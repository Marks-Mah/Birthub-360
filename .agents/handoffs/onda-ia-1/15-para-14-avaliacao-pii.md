- De: Agente 15
- Para: Agente 14
- Onda: IA-1
- Status: aberto
- Prioridade: normal

## Problema

Revisão de segurança dos guardrails PII implementados pelo Agente 07 em `src/lib/ai/guardrails/pii.guard.ts`.

## Arquivo(s) envolvido(s)

- `src/lib/ai/guardrails/pii.guard.ts`
- `src/lib/ai/guardrails/toxicity.guard.ts`
- `src/lib/ai/guardrails/index.ts`

## Alteração necessária

Adicionar teste de segurança para validação dos guardrails PII na suíte de testes, cobrindo:

1. Falsos positivos em padrões numéricos (CEP, protocolos, IDs)
2. Logs de tentativas bloqueadas em `AILog` ou tabela dedicada
3. Redação reversível (placeholders estáticos vs tamanho dinâmico)
4. Prompt injection no prompt antes de enviar ao provider
5. Encoding bypass (Base64, hex, unicode escape)

## Teste esperado

Teste em `tests/security/pii-guardrail.spec.ts` que:
- Valida que CPF/CNPJ falsos não bloqueiam
- Confirma que redação não vaza metadados de tamanho
- Verifica que tentativas bloqueadas são registradas
- Testa bypass por encoding

## Contexto adicional

Revisão completa em handoff: `.agents/handoffs/onda-ia-1/15-para-14-avaliacao-pii.md`

Decisão: APROVADO COM RESERVA para Onda 1. Implementação base é sólida, mas melhorias recomendadas para ondas posteriores.
