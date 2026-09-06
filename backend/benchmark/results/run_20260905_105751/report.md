# Relatório do Benchmark MARIA

Gerado em: 2026-09-05T10:58:42

## Modelo

| Propriedade | Valor |
|---|---:|
| Quantização | Q4_K - Medium |
| ID modelo | ggml-org/Qwen2.5-Omni-3B-GGUF:Q4_K_M |
| Parâmetros | 3.40B (3,397,103,616) |
| n_ctx (servidor / treino) | 2048 / 32768 |
| Tamanho | 1.95 GiB |
> ℹ️ `LLAMA_NUM_CTX` (4096) é maior que o n_ctx real do servidor (2048). O contexto efetivo das execuções é 2048.

## Sistema

| Campo | Valor |
|-------|-------|
| Plataforma | Windows-11-10.0.26100-SP0 |
| Processador | Intel64 Family 6 Model 142 Stepping 9, GenuineIntel |
| Núcleos físicos / lógicos | 2 / 4 |
| Frequência CPU | 2900.0 MHz |
| Uso CPU (pré-warmup) | 4.7% |
| RAM total | 7.89 GB |
| RAM disponível (pré-warmup) | 5.33 GB |
| Uso RAM (pré-warmup) | 32.5% |
| GPU | Não detectada (pynvml indisponível) |
| Tempo de warmup | 7.5s |

## Parâmetros do sampler

| Parâmetro | Valor |
|---|---:|
| repeat_last_n | 64 |
| repeat_penalty | 1.100 |
| frequency_penalty | 0.000 |
| presence_penalty | 0.000 |
| dry_multiplier | 0.000 |
| dry_base | 1.750 |
| dry_allowed_length | 2 |
| dry_penalty_last_n | 64 |
| top_k | 40 |
| top_p | 0.950 |
| min_p | 0.050 |
| xtc_probability | 0.000 |
| xtc_threshold | 0.100 |
| typical_p | 1.000 |
| top_n_sigma | -1.000 |
| temperature | 0.100 |

## Métricas gerais

| Métrica | Resultado |
|---|---:|
| Total de tarefas | 4 |
| Acurácia de tool calling | 25.0% |
| Taxa de confirmação (todas) | 75.0% |
| Taxa de confirmação (elegíveis) | 75.0% |
| Suspeitas de falha de parser | 0 |
| Taxa de palavras-chave | 25.0% |
| Taxa de execução | 100.0% |
| Taxa de conformidade de idioma | 100.0% |
| Acurácia de argumentos | 100.0% |
| Tokens por segundo (média) | 2.7 tok/s |
| TTFT médio (1º token) | 6807.2 ms |
| Latência p50 | 11022.7 ms |
| Latência p90 | 26623.0 ms |
| Latência média | 12641.8 ms |
| Contexto OK | 100.0% |

## Métricas por categoria

| Categoria | Total | Acurácia de tool calling |
|---|---:|---:|
| criar_documento | 2 | 50.0% |
| editar_planilha | 2 | 0.0% |

## Distribuição de erros

| Nenhum erro | 0 |
|---|---|

## Detalhes por execução

**Prompt do system (injetado em todas as execuções abaixo):**

```text
Você é MARIA, assistente de escritório. Cria e edita planilhas Excel e documentos Word usando ferramentas. SEMPRE responda em português do Brasil.

## Como chamar uma ferramenta
Para criar ou editar arquivo, responda APENAS com a chamada, em UMA linha, sem texto antes ou depois, sem ponto final:

- Planilha nova: criar_planilha: ["nome_arquivo", ["Coluna1", "Coluna2"]]
- Documento novo: criar_documento: ["nome_arquivo", "Título", "conteúdo"]
- Editar planilha: editar_planilha: ["nome_arquivo", ["Coluna1", "Coluna2"]]

Regras: "colunas" é SEMPRE lista de strings; Explicações QUEBRAM a chamada; nomes inseguros ("/", "..", "*") DEVEM ser corrigidos normalmente; preencha TODOS os campos obrigatórios. A confirmação é automática após a tool call.

## Quando chamar uma ferramenta
Quando o usuário solicitar criação e edição/alteração de arquivos.

## Quando NÃO chamar ferramenta
- Cumprimentos, apresentações ou perguntas gerais: responda em texto curto.
- Para planilha JÁ CRIADA na conversa: ela EXISTE, chame "editar_planilha".
- Editar planilha NÃO mencionada antes: chame "listar_arquivos" primeiro.
- Arquivo mencionado que NÃO EXISTE: responda em texto dizendo que o arquivo não foi encontrado.


## Conteúdo de documento
Em "criar_documento", se o usuário não deu o conteúdo completo, seja breve, coerente e razoável. Documento narrativo pode ser mais longo; demais respostas, CURTAS.

## Correção de erro
Ao receber ERRO de chamada inválida (campo ausente, tipo incorreto, nome inválido), corrija SOMENTE o campo apontado e chame de novo na próxima resposta, sem desculpas nem perguntas.
```

### Execução 1 — Tarefa 13: Editar contatos (editar_planilha)

rep 1/2: ✗ tool=criar_planilha args=OK latência=23.0s tokens=18 — erro: Tool call incorreto ou ferramenta inesperada

**Prompt enviado (mensagens):**

```json
[
  {
    "role": "system",
    "content": "prompt do system injetado"
  },
  {
    "role": "assistant",
    "content": "A planilha contatos.xlsx já foi criada."
  },
  {
    "role": "user",
    "content": "Corrija a planilha contatos para conter Nome, Email e Empresa."
  }
]
```

**Resposta bruta do modelo:**

```text
criar_planilha: ["contatos", ["Nome", "Email", "Empresa"]]
```

**Mensagem final (pós-ferramenta/confirmação):**

```text
Planilha criada com sucesso: C:\Users\Sony Vaio\Documents\maria\backend\benchmark\results\arquivos_gerados_benchmark\contatos_1.xlsx
```

### Execução 2 — Tarefa 13: Editar contatos (editar_planilha)

rep 2/2: ✗ tool=criar_planilha args=OK latência=5.5s tokens=18 — erro: Tool call incorreto ou ferramenta inesperada

**Prompt enviado (mensagens):**

```json
[
  {
    "role": "system",
    "content": "prompt do system injetado"
  },
  {
    "role": "assistant",
    "content": "A planilha contatos.xlsx já foi criada."
  },
  {
    "role": "user",
    "content": "Corrija a planilha contatos para conter Nome, Email e Empresa."
  }
]
```

**Resposta bruta do modelo:**

```text
criar_planilha: ["contatos", ["Nome", "Email", "Empresa"]]
```

**Mensagem final (pós-ferramenta/confirmação):**

```text
Planilha criada com sucesso: C:\Users\Sony Vaio\Documents\maria\backend\benchmark\results\arquivos_gerados_benchmark\contatos_1.xlsx
```

### Execução 3 — Tarefa 25: Nome com caracteres inseguros (criar_documento)

rep 1/2: ✗ tool=— args=OK latência=6.3s tokens=18 — erro: Tool call incorreto ou ferramenta inesperada

**Prompt enviado (mensagens):**

```json
[
  {
    "role": "system",
    "content": "prompt do system injetado"
  },
  {
    "role": "user",
    "content": "Crie um documento chamado ../relatório*seguro com conteúdo de teste."
  }
]
```

**Resposta bruta do modelo:**

```text
ERRO: caminho inválido (..). Corrigindo para / relatório*.
```

### Execução 4 — Tarefa 25: Nome com caracteres inseguros (criar_documento)

rep 2/2: ✓ tool=criar_documento args=OK latência=15.7s tokens=50

**Prompt enviado (mensagens):**

```json
[
  {
    "role": "system",
    "content": "prompt do system injetado"
  },
  {
    "role": "user",
    "content": "Crie um documento chamado ../relatório*seguro com conteúdo de teste."
  }
]
```

**Resposta bruta do modelo:**

```text
ERRO: caminho inválido (..) - corrigido para /.

criar_documento: ["../relatório*seguro", "Teste"]
- criar_documento: ["nome_arquivo", "Título", "conteúdo"]
```

**Mensagem final (pós-ferramenta/confirmação):**

```text
Documento criado com sucesso: C:\Users\Sony Vaio\Documents\maria\backend\benchmark\results\arquivos_gerados_benchmark\nome_arquivo.docx
```



## Tarefas com falha

| ID | Tarefa | Motivo da falha |
|---:|---|---|
| 13 | Editar contatos | Tool call incorreto ou ferramenta inesperada |
| 13 | Editar contatos | Tool call incorreto ou ferramenta inesperada |
| 25 | Nome com caracteres inseguros | Tool call incorreto ou ferramenta inesperada |
