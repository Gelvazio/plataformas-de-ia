# Plataformas de IA - Detalhes e Preços

<!-- rules-ai:global -->
> 🌐 **Regras globais:** além das regras deste arquivo, valem as regras globais de
> `C:ontesules-ai` (`regras/*.md`, entregues a cada IA pelo arquivo global dela). Em divergência,
> a regra deste projeto prevalece, e o usuário decide o que fazer com cada divergência
> (`rules-ai/CONFLITOS.md`). Ao finalizar uma tarefa: commit + push.


Este documento contém informações detalhadas sobre as principais plataformas de Inteligência Artificial, suas características, modelos disponíveis e estrutura de preços.

---

## 1. OpenAI

### Descrição
A OpenAI é uma das empresas mais influentes no campo de IA, responsável pelo GPT (Generative Pre-trained Transformer). Seus modelos são amplamente utilizados para geração de texto, código, imagens e análise de dados.

### Modelos Principais

#### GPT-4o (Omni)
- **Lançamento:** Maio 2024
- **Características:** Modelo multimodal (texto, áudio, imagem e vídeo)
- **Capacidades:** Raciocínio avançado, programação, análise de documentos, tradução em tempo real
- **Uso:** Aplicações empresariais complexas, pesquisa, desenvolvimento

#### GPT-4o Mini
- **Lançamento:** Julho 2024
- **Características:** Versão compacta e rápida do GPT-4o
- **Capacidades:** Tarefas de texto e código com bom custo-benefício
- **Uso:** Chatbots, automação de tarefas, integrações

#### GPT-4 Turbo
- **Lançamento:** Novembro 2023
- **Características:** Versão otimizada do GPT-4
- **Capacidades:** Contexto de 128K tokens, resposta rápida
- **Uso:** Análise de documentos longos, desenvolvimento

#### GPT-3.5 Turbo
- **Lançamento:** 2022
- **Características:** Modelo rápido e econômico
- **Capacidades:** Geração de texto, código simples, chat
- **Uso:** Aplicações de baixo custo, prototipagem

### Outros Modelos

#### DALL·E 3
- **Geração de imagens** a partir de descrições de texto
- **Alta qualidade e detalhes**
- **Uso:** Design, marketing, arte

#### Whisper
- **Reconhecimento de fala** para transcrição
- **Suporte a múltiplos idiomas**
- **Uso:** Transcrições, legendas, análise de áudio

#### Embeddings
- **Representações vetoriais** de texto
- **Busca semântica e similaridade**
- **Uso:** RAG, recomendações, clustering

### Estrutura de Preços (2024)

#### GPT-4o
- **Input:** $2.50 por 1M tokens
- **Output:** $10.00 por 1M tokens
- **Batch:** $1.25 (input) / $5.00 (output) por 1M tokens

#### GPT-4o Mini
- **Input:** $0.15 por 1M tokens
- **Output:** $0.60 por 1M tokens
- **Batch:** $0.075 (input) / $0.30 (output) por 1M tokens

#### GPT-4 Turbo
- **Input:** $10.00 por 1M tokens
- **Output:** $30.00 por 1M tokens
- **Batch:** $5.00 (input) / $15.00 (output) por 1M tokens

#### GPT-3.5 Turbo
- **Input:** $0.50 por 1M tokens
- **Output:** $1.50 por 1M tokens
- **Batch:** $0.25 (input) / $0.50 (output) por 1M tokens

#### DALL·E 3
- **Standard:** $0.40 por imagem
- **HD:** $0.80 por imagem

#### Whisper
- **Turbo:** $0.006 por minuto de áudio
- **Base:** $0.006 por minuto de áudio

#### Embeddings
- **text-embedding-3-small:** $0.02 por 1M tokens
- **text-embedding-3-large:** $0.13 por 1M tokens

### API Keys e Limites
- **Free Tier:** $5.00 de crédito (expira em 3 meses)
- **Rate Limits:** Variam por modelo e plano
- **Billing:** Pago por uso, sem contrato mínimo

---

## 2. Anthropic

### Descrição
A Anthropic é uma empresa de IA focada em segurança e alinhamento. Seus modelos Claude são conhecidos pelo raciocínio robusto, comportamento seguro e capacidade de processar documentos longos.

### Modelos Principais

#### Claude 3.5 Sonnet
- **Lançamento:** Junho 2024
- **Características:** Equilíbrio entre performance e velocidade
- **Capacidades:** Raciocínio complexo, código, análise de documentos
- **Uso:** Aplicações empresariais, pesquisa, desenvolvimento

#### Claude 3.5 Haiku
- **Lançamento:** Outubro 2024
- **Características:** Modelo rápido e compacto
- **Capacidades:** Tarefas rápidas de texto e código
- **Uso:** Chatbots, automação, processamento em tempo real

#### Claude 3 Opus
- **Lançamento:** Março 2024
- **Características:** Modelo mais capaz da família Claude 3
- **Capacidades:** Raciocínio avançado, análise complexa
- **Uso:** Pesquisa, aplicações críticas

#### Claude 3 Sonnet
- **Lançamento:** Março 2024
- **Características:** Balanceamento de performance e custo
- **Capacidades:** Tarefas gerais de IA
- **Uso:** Aplicações comerciais, integrações

#### Claude 3 Haiku
- **Lançamento:** Março 2024
- **Características:** Modelo mais rápido e econômico
- **Capacidades:** Respostas rápidas, tarefas simples
- **Uso:** Chat, processamento de alto volume

### Estrutura de Preços (2024)

#### Claude 3.5 Sonnet
- **Input:** $3.00 por 1M tokens
- **Output:** $15.00 por 1M tokens

#### Claude 3.5 Haiku
- **Input:** $0.80 por 1M tokens
- **Output:** $4.00 por 1M tokens

#### Claude 3 Opus
- **Input:** $15.00 por 1M tokens
- **Output:** $75.00 por 1M tokens

#### Claude 3 Sonnet
- **Input:** $3.00 por 1M tokens
- **Output:** $15.00 por 1M tokens

#### Claude 3 Haiku
- **Input:** $0.25 por 1M tokens
- **Output:** $1.25 por 1M tokens

### API Keys e Limites
- **Free Tier:** Disponível com limites de uso
- **Rate Limits:** Baseados em RPM (requests por minuto) e TPM (tokens por minuto)
- **Billing:** Pago por uso, opções de contrato empresarial

---

## 3. Google (Gemini)

### Descrição
O Google oferece a família de modelos Gemini, desenvolvidos pelo Google DeepMind. São modelos multimodais avançados com forte integração ao ecossistema Google.

### Modelos Principais

#### Gemini 1.5 Pro
- **Lançamento:** Fevereiro 2024
- **Características:** Modelo multimodal avançado
- **Capacidades:** Contexto de 1M tokens, análise de vídeo, áudio, código
- **Uso:** Aplicações complexas, análise de grandes volumes de dados

#### Gemini 1.5 Flash
- **Lançamento:** Maio 2024
- **Características:** Modelo rápido e econômico
- **Capacidades:** Respostas rápidas, multimodal
- **Uso:** Aplicações em tempo real, alto volume

#### Gemini 1.0 Pro
- **Lançamento:** Dezembro 2023
- **Características:** Modelo multimodal estabelecido
- **Capacidades:** Texto, imagem, código
- **Uso:** Aplicações gerais de IA

### Estrutura de Preços (2024)

#### Gemini 1.5 Pro
- **Input:** $1.25 por 1M tokens
- **Output:** $5.00 por 1M tokens
- **Contexto:** Até 1M tokens

#### Gemini 1.5 Flash
- **Input:** $0.075 por 1M tokens
- **Output:** $0.30 por 1M tokens
- **Contexto:** Até 1M tokens

#### Gemini 1.0 Pro
- **Input:** $0.50 por 1M tokens
- **Output:** $1.50 por 1M tokens

### API Keys e Limites
- **Free Tier:** Disponível com limite mensal
- **Rate Limits:** Variam por região e modelo
- **Billing:** Pago por uso, integração com Google Cloud

---

## 4. Meta (Llama)

### Descrição
A Meta oferece a família de modelos Llama como open-source, permitindo que empresas executem os modelos em seus próprios servidores ou usem versões hospedadas.

### Modelos Principais

#### Llama 3.1 405B
- **Lançamento:** Julho 2024
- **Características:** Modelo open-source de maior capacidade
- **Capacidades:** Raciocínio avançado, código, análise complexa
- **Uso:** Aplicações empresariais, pesquisa, deploy próprio

#### Llama 3.1 70B
- **Lançamento:** Julho 2024
- **Características:** Modelo balanceado
- **Capacidades:** Tarefas gerais de IA
- **Uso:** Aplicações comerciais, integrações

#### Llama 3.1 8B
- **Lançamento:** Julho 2024
- **Características:** Modelo compacto e rápido
- **Capacidades:** Tarefas rápidas, baixo custo
- **Uso:** Dispositivos edge, aplicações leves

#### Llama 3 70B
- **Lançamento:** Abril 2024
- **Características:** Versão anterior do 70B
- **Capacidades:** Boa performance geral
- **Uso:** Aplicações estabelecidas

#### Llama 3 8B
- **Lançamento:** Abril 2024
- **Características:** Versão anterior do 8B
- **Capacidades:** Tarefas leves
- **Uso:** Deploy em dispositivos, aplicações simples

### Estrutura de Preços (2024)

#### Versão Open-Source (Self-Hosted)
- **Custo:** Free (baixar e executar em infraestrutura própria)
- **Requisitos:** Hardware poderoso para modelos grandes
- **Licença:** Llama Community License (uso comercial permitido)

#### Versão Hospedada (via parceiros)
- **Preços variam** por provedor (AWS, Azure, Google Cloud, Replicate, etc.)
- **Exemplo típico (70B):** ~$1-3 por 1M tokens
- **Exemplo típico (8B):** ~$0.10-0.30 por 1M tokens

### Vantagens e Desvantagens
- **Vantagens:** Controle total, privacidade de dados, sem custos de API
- **Desvantagens:** Requer infraestrutura, manutenção, conhecimento técnico

---

## 5. Mistral AI

### Descrição
A Mistral AI é uma empresa europeia que oferece modelos de IA de alta performance, incluindo opções open-source e modelos comerciais.

### Modelos Principais

#### Mistral Large
- **Características:** Modelo de alta capacidade
- **Capacidades:** Raciocínio complexo, código, análise
- **Uso:** Aplicações empresariais

#### Mistral Medium
- **Características:** Balanceamento de performance e custo
- **Capacidades:** Tarefas gerais
- **Uso:** Aplicações comerciais

#### Mistral Small
- **Características:** Modelo rápido e econômico
- **Capacidades:** Tarefas simples
- **Uso:** Chat, automação

#### Codestral
- **Características:** Especializado em código
- **Capacidades:** Geração e análise de código
- **Uso:** Desenvolvimento de software

#### Mixtral 8x7B
- **Características:** Modelo Mixture-of-Experts open-source
- **Capacidades:** Boa performance com baixo custo
- **Uso:** Deploy próprio, aplicações comerciais

### Estrutura de Preços (2024)

#### Mistral Large
- **Input:** $4.00 por 1M tokens
- **Output:** $12.00 por 1M tokens

#### Mistral Medium
- **Input:** $2.70 por 1M tokens
- **Output:** $8.10 por 1M tokens

#### Mistral Small
- **Input:** $0.20 por 1M tokens
- **Output:** $0.60 por 1M tokens

#### Codestral
- **Input:** $0.25 por 1M tokens
- **Output:** $0.25 por 1M tokens

#### Mixtral 8x7B (Open-Source)
- **Free** para download e uso próprio
- **Versão hospedada:** ~$0.50-1.00 por 1M tokens

---

## 6. Cohere

### Descrição
A Cohere foca em modelos de IA para aplicações empresariais, com forte ênfase em geração de texto, embeddings e busca semântica.

### Modelos Principais

#### Command R+
- **Características:** Modelo avançado com RAG integrado
- **Capacidades:** Raciocínio, busca de informações, código
- **Uso:** Aplicações empresariais complexas

#### Command R
- **Características:** Modelo balanceado com RAG
- **Capacidades:** Tarefas gerais de IA
- **Uso:** Aplicações comerciais

#### Command
- **Características:** Modelo de geração de texto
- **Capacidades:** Escrita, resumo, tradução
- **Uso:** Aplicações de conteúdo

#### Embed
- **Características:** Modelos de embeddings
- **Capacidades:** Busca semântica, similaridade
- **Uso:** RAG, recomendações

#### Rerank
- **Características:** Re-ranking de resultados
- **Capacidades:** Melhoria de precisão em busca
- **Uso:** Sistemas de busca, RAG

### Estrutura de Preços (2024)

#### Command R+
- **Input:** $3.00 por 1M tokens
- **Output:** $15.00 por 1M tokens

#### Command R
- **Input:** $0.50 por 1M tokens
- **Output:** $1.50 por 1M tokens

#### Command
- **Input:** $1.50 por 1M tokens
- **Output:** $2.00 por 1M tokens

#### Embed
- **Input:** $0.10 por 1M tokens

#### Rerank
- **Input:** $0.10 por 1M tokens

---

## 7. Perplexity AI

### Descrição
A Perplexity AI oferece um motor de busca com IA integrada, combinando modelos de linguagem com busca na web em tempo real.

### Modelos Principais

#### Sonar (Online)
- **Características:** Busca em tempo real + IA
- **Capacidades:** Respostas com fontes atualizadas
- **Uso:** Pesquisa, informações atualizadas

#### Sonar (Offline)
- **Características:** IA sem busca na web
- **Capacidades:** Geração de texto baseada em conhecimento interno
- **Uso:** Aplicações offline, privacidade

### Estrutura de Preços (2024)

#### API Usage
- **Sonar Online:** ~$5-10 por 1M tokens (varia por operação)
- **Sonar Offline:** ~$1-3 por 1M tokens

#### Plano Pro
- **$20/mês:** Uso ilimitado do chat
- **500 buscas por dia** com modelos avançados

---

## 8. DeepSeek

### Descrição
A DeepSeek é uma empresa chinesa que oferece modelos de IA de alta performance com custos muito competitivos, incluindo modelos de raciocínio avançado (R1).

### Modelos Principais

#### DeepSeek-V4 Pro
- **Características:** Modelo avançado com raciocínio
- **Capacidades:** Raciocínio complexo, código, análise
- **Uso:** Aplicações gerais de alta performance

#### DeepSeek-V4 Flash
- **Características:** Modelo rápido e econômico
- **Capacidades:** Respostas rápidas, multitarefa
- **Uso:** Aplicações em tempo real, alto volume

#### DeepSeek-V3.2
- **Características:** Versão estabelecida
- **Capacidades:** Tarefas gerais de IA
- **Uso:** Aplicações comerciais

#### DeepSeek-R1
- **Características:** Modelo de raciocínio (reasoning)
- **Capacidades:** Raciocínio profundo, análise complexa
- **Uso:** Pesquisa, aplicações críticas

### Estrutura de Preços (2024-2026)

#### DeepSeek-V4 Pro
- **Input:** $1.69 por 1M tokens
- **Output:** $3.38 por 1M tokens
- **Cache Hit:** $0.14 por 1M tokens

#### DeepSeek-V4 Flash
- **Input:** $0.14 por 1M tokens
- **Output:** $0.28 por 1M tokens
- **Cache Hit:** $0.028 por 1M tokens

#### DeepSeek-V3.2
- **Input:** $0.28 por 1M tokens
- **Output:** $0.42 por 1M tokens
- **Cache Hit:** $0.028 por 1M tokens

#### DeepSeek-R1
- **Input:** $0.28 por 1M tokens (CNY: ¥0.004 por 1K tokens)
- **Output:** $1.12 por 1M tokens (CNY: ¥0.016 por 1K tokens)

### API Keys e Limites
- **Free Tier:** Disponível com limites
- **Billing:** Pago por uso, planos flexíveis
- **Nota:** Preços podem variar por região e provedor (Baidu Qianfan, Tencent Cloud, etc.)

---

## 9. Verdent AI

### Descrição
A Verdent AI é uma plataforma de agentes de IA para desenvolvimento de software, disponível como extensão VS Code e aplicativo desktop. Usa sistema de créditos e oferece Eco Mode para uso econômico.

### Características
- **Integração:** VS Code e Desktop app
- **Eco Mode:** Uso de modelos de baixo custo sem consumir créditos
- **BYOK:** Bring Your Own Key - use suas próprias API keys
- **Créditos:** Sistema baseado em créditos que podem ser usados em múltiplos produtos

### Estrutura de Preços (2024)

#### Planos de Assinatura

| Plano | Preço | Créditos Mensais | Eco Mode | Deploy Apps |
|-------|-------|-----------------|----------|--------------|
| Free Trial | $0 (7 dias) | 100 | Sim | 0 |
| Starter | $19/mês | 320-480* | Sim | 2 |
| Pro | $59/mês | 1,000-1,500* | Sim | 10 |
| Max | $179/mês | 3,000-4,500* | Sim | Ilimitado |

*Atualmente com bônus de 50% (480/1,500/4,500 em vez de 320/1,000/3,000)

#### Top-Ups (Créditos Adicionais)
- 340 créditos: $20
- 1,020 créditos: $60
- 1,360 créditos: $80
- 1,700 créditos: $100
- 3,400 créditos: $200

### Funcionalidades por Plano
- **Free Trial:** 100 créditos por 7 dias, acesso a modelos básicos
- **Starter:** Eco Mode, deploy até 2 apps, todos os modelos
- **Pro:** Eco Mode estendido, deploy até 10 apps, maior quota
- **Max:** Eco Mode máximo, deploy ilimitado, quota máxima

### Links
- **Site:** https://www.verdent.ai
- **Pricing:** https://www.verdent.ai/pricing

---

## 10. Devin AI

### Descrição
A Devin AI (Cognition) é uma plataforma de agentes de IA autônomos para desenvolvimento de software. Oferece tanto agentes locais quanto cloud agents, com diferentes planos para indivíduos e equipes.

### Características
- **Agentes Autônomos:** Agentes que executam tarefas complexas de forma independente
- **Cloud Agents:** Agentes em nuvem com recursos avançados
- **Local Agents:** Agentes que rodam na sua máquina (Cascade, Devin CLI)
- **ACUs:** Agent Compute Units - sistema de medição para planos Enterprise

### Estrutura de Preços (2026)

#### Planos Individuais

| Plano | Preço | Características |
|-------|-------|------------------|
| Free | $0/mês | Quota leve, modelos limitados, Tab completions ilimitados |
| Pro | $20/mês | Modelos frontier (OpenAI, Claude, Gemini, SpaceXAI), cloud agents, Devin API |
| Max | $200/mês | Quota significativamente maior, tudo do Pro, sem limite diário |

#### Planos de Equipe

| Plano | Preço | Características |
|-------|-------|------------------|
| Teams | $80/mês mínimo + $40/seat | Até 200 usuários, seats completos e flex, analytics centralizados |
| Enterprise | Sob consulta | ACUs, SSO/OIDC, VPC deployment, audit logs |

#### Detalhes de Seats (Teams)
- **Full Seat:** $40/mês por usuário - quota generosa
- **Flex Seat:** Free - usa pool de créditos compartilhado, para usuários ocasionais
- **Admin Seat:** Free - para gerenciamento sem acesso ao Devin

### Billing
- **Uso:** Quotas diárias e semanais, renovam automaticamente
- **Extra Usage:** Comprado a preços de API após exceder quota
- **Enterprise:** Faturado em ACUs (Agent Compute Units)

### Links
- **Site:** https://devin.ai
- **Pricing:** https://devin.ai/pricing
- **Docs:** https://docs.devin.ai

---

## 11. Cursor

### Descrição
O Cursor é um editor de código AI-first, integrado com modelos frontier e com sistema de roteamento inteligente. Oferece planos individuais e empresariais com uso baseado em créditos.

### Características
- **Cursor Router:** Roteamento automático entre modelos para equilibrar custo e performance
- **Grok Models:** Modelos proprietários desenvolvidos com SpaceXAI
- **Composer:** Agente de codificação avançado
- **Bugbot:** Revisão de código automatizada
- **Cloud Agents:** Agentes em nuvem para tarefas complexas

### Estrutura de Preços (2026)

#### Planos Individuais

| Plano | Preço | Cursor Models | Other Models |
|-------|-------|---------------|---------------|
| Hobby | Free | Limitado | Limitado |
| Pro | $20/mês | Incluído | $20 de crédito |
| Pro+ | $60/mês | Incluído | $70 de crédito |
| Ultra | $200/mês | Incluído | $400 de crédito |

#### Planos de Equipe

| Plano | Preço | Características |
|-------|-------|------------------|
| Teams Standard | $40/user/mo | Team allowance, analytics, billing centralizado |
| Teams Premium | $120/user/mo | 5x allowance, SAML/OIDC, SCIM |
| Enterprise | Sob consulta | Pooled usage, invoice billing, audit logs |

#### Modelos Cursor (Preços por 1M tokens)

| Modelo | Input | Cache Read | Output | Notas |
|--------|-------|------------|--------|-------|
| Grok 4.7 | $2.00 | $0.50 | $6.00 | Long context até 500k tokens |
| Grok 4.7 (Fast) | $4.00 | $1.00 | $12.00 | 2x mais rápido |
| Grok 4.6 | $2.00 | $0.50 | $6.00 | - |
| Grok 4.5 | $2.00 | $0.50 | $6.00 | - |
| Composer 2.5 | $0.50 | $0.20 | $2.50 | - |

### Links
- **Site:** https://cursor.com
- **Pricing:** https://cursor.com/pricing
- **Models:** https://cursor.com/docs/models-and-pricing

---

## 12. Kiro.dev

### Descrição
A Kiro é uma plataforma de IA para desenvolvimento de software com agentes estruturados (Spec mode e Vibe mode). Usa sistema de créditos com consumo fracionário baseado na complexidade da tarefa.

### Características
- **Spec Mode:** Workflow estruturado de desenvolvimento
- **Vibe Mode:** Conversação livre com agentes
- **Unified Limits:** Pool único de créditos para todas as requisições
- **Fractional Credits:** Consumo baseado em complexidade (0.01 crédito mínimo)

### Estrutura de Preços (2024-2026)

#### Planos Individuais

| Plano | Preço | Créditos Mensais | Overage |
|-------|-------|------------------|---------|
| Free | $0 | 50 | Não disponível |
| Pro | $20/mês | 1,000 | $0.04/credit |
| Pro+ | $40/mês | 2,000 | $0.04/credit |
| Pro Max | $100/mês | 5,000 | $0.04/credit |
| Power | $200/mês | 10,000 | $0.04/credit |

#### Free Trial
- **Novos usuários:** 500 créditos bônus por 14 dias
- **Primeiro upgrade:** $20 de crédito na primeira assinatura paga

#### Detalhes de Billing
- **Prorata:** Upgrade no meio do mês cobra fração proporcional
- **Downgrade:** Cobra mês completo do plano anterior
- **AWS GovCloud:** ~20% mais caro, sem Free tier

### Links
- **Site:** https://kiro.dev
- **Pricing:** https://kiro.dev/pricing
- **Docs:** https://kiro.dev/docs/billing

---

## 13. Google Antigravity

### Descrição
O Google Antigravity é uma plataforma de agentes de IA do Google, com múltiplas superfícies: Desktop app, CLI, SDK e IDE. Usa modelos Gemini com harness otimizado para agentes.

### Características
- **Antigravity 2.0:** Desktop app autônomo para gerenciamento de agentes
- **Antigravity CLI:** Interface terminal-first para uso rápido
- **Antigravity SDK:** Framework Python para agentes customizados
- **Antigravity IDE:** IDE completo com agentes integrados
- **Gemini 3.8 Flash:** Modelo subjacente com alta velocidade e contexto

### Modelos
- **Gemini 3.8 Flash:** Modelo principal do Antigravity
- **Context Window:** Capacidade de contexto extendida
- **Subagents:** Delegação paralela de tarefas para subagentes assíncronos

### Preços
- **API:** Disponível via Gemini API com preços padrão do Gemini
- **Enterprise:** Planos sob consulta para uso empresarial
- **Free Tier:** Disponível com limites

### Links
- **Site:** https://antigravity.google
- **Docs:** https://antigravity.google/docs
- **API:** https://ai.google.dev/gemini-api/docs/antigravity-agent

---

## 14. Claude Code (Anthropic)

### Descrição
O Claude Code é a ferramenta de linha de comando da Anthropic para desenvolvimento com IA. Está incluído nos planos Pro e Max do Claude, e também pode ser usado com créditos da API.

### Características
- **CLI:** Interface de linha de comando para desenvolvimento
- **Code Execution:** Execução de código em ambiente seguro
- **Fast Mode:** Modo de alta velocidade para modelos Opus
- **Projects:** Gerenciamento de projetos com contexto compartilhado

### Estrutura de Preços (2026)

#### Via Assinatura Claude

| Plano | Preço | Claude Code |
|-------|-------|-------------|
| Pro | $17-20/mês | Incluído |
| Max 5x | $100/mês | Incluído (5x uso) |
| Max 20x | $200/mês | Incluído (20x uso) |
| Team Standard | $25/seat | Incluído |
| Team Premium | $125/seat | Incluído |

#### Via API Credits
- **Preço:** Cobrado por token nas taxas padrão da API Anthropic
- **Fast Mode:** $30 (input) / $150 (output) por 1M tokens para Opus 4.8

### Limites
- **Pro:** Uso compartilhado com Claude chat
- **Max:** Quotas maiores (5x ou 20x do Pro)
- **Free:** Não disponível - requer plano pago ou API credits

### Links
- **Site:** https://claude.com/product/claude-code
- **Pricing:** https://claude.com/pricing

---

## 15. OpenAI Codex

### Descrição
O OpenAI Codex é a ferramenta de desenvolvimento com IA da OpenAI, integrada ao ChatGPT. Inclui modelos GPT-5.x e GPT-6.x específicos para código, com suporte a CLI, SDK e IDE.

### Características
- **Local Messages:** Execução local de agentes
- **Cloud Chats:** Agentes em nuvem com recursos avançados
- **Code Reviews:** Revisão automática de código
- **GPT-5.6 & GPT-6:** Modelos especializados em código
- **GPT-6 Astra:** Modelo avançado com reasoning

### Estrutura de Preços (2026)

#### Incluído em Planos ChatGPT

| Plano | Preço | Codex |
|-------|-------|-------|
| Free | $0 | Trial limitado |
| Plus | $20/mês | Limites semanais |
| Pro 5x | $100/mês | 5x uso do Plus |
| Pro 20x | $200/mês | 20x uso do Plus |
| Business | $20-25/seat | Planos empresariais |
| Enterprise | Sob consulta | Enterprise features |

#### Modelos GPT-5.6 (Limites por 5h - Plus)

| Modelo | Local Messages | Cloud Chats | Code Reviews |
|--------|----------------|-------------|--------------|
| GPT-5.6 Sol | 15-90 | N/A | N/A |
| GPT-5.6 Terra | 20-110 | N/A | N/A |
| GPT-5.6 Luna | 50-280 | N/A | N/A |
| GPT-5.5 | 15-80 | N/A | N/A |
| GPT-5.4 | 20-100 | N/A | N/A |
| GPT-5.4 mini | 60-350 | N/A | N/A |

#### Credits
- **Plus/Pro:** Podem comprar créditos adicionais após exceder limites
- **Business/Enterprise:** Credits de workspace disponíveis
- **API Key:** Uso via API key cobrado nas taxas padrão

### Links
- **Site:** https://chatgpt.com/codex
- **Pricing:** https://chatgpt.com/codex/pricing

---

## 16. Alibaba Qwen (Tongyi Qianwen)

### Descrição
A Alibaba Cloud oferece a família de modelos Qwen (Tongyi Qianwen) através do Model Studio. São modelos de alta performance com suporte a thinking mode e contextos longos.

### Modelos Principais

#### Qwen-Max
- **Características:** Modelo flagship da família Qwen
- **Capacidades:** Raciocínio avançado, thinking mode, contexto longo
- **Uso:** Aplicações empresariais complexas

#### Qwen-Plus
- **Características:** Modelo balanceado
- **Capacidades:** Tarefas gerais de IA
- **Uso:** Aplicações comerciais

#### Qwen-Flash
- **Características:** Modelo rápido e econômico
- **Capacidades:** Respostas rápidas
- **Uso:** Aplicações em tempo real

### Estrutura de Preços (2026)

#### Qwen-Max (China - Beijing)

| Modelo | Input | Output | Modo |
|--------|-------|--------|------|
| qwen3.8-max-prime | $3.301 | $9.902 | Thinking/Non-thinking |
| qwen3.8-max | $1.65 | $4.951 | Thinking/Non-thinking |
| qwen3.7-max | $1.65 | $4.951 | Thinking/Non-thinking |

#### Qwen-Plus (China - Beijing)

| Modelo | Input (≤256K) | Output (≤256K) | Input (256K-1M) | Output (256K-1M) |
|--------|--------------|----------------|-----------------|-------------------|
| qwen3.7-plus | $0.276 | $1.101 | $0.826 | $3.301 |
| qwen3.6-plus | $0.331 | $1.981 | $1.321 | $7.922 |
| qwen3.5-plus | $0.138 | $0.826 | $0.688 | $4.128 |

#### Preços em Yuan (China)

| Modelo | Input (CNY/M) | Output (CNY/M) |
|--------|---------------|----------------|
| qwen3.7-max | ¥14.4 | ¥43.2 |
| qwen3.7-plus (≤256K) | ¥2.4 | ¥9.6 |
| qwen3.7-plus (256K-1M) | ¥7.2 | ¥28.8 |

### Links
- **Site:** https://www.alibabacloud.com/product/model-studio
- **Pricing:** https://www.alibabacloud.com/help/en/model-studio/model-pricing

---

## 17. Baidu ERNIE (Qianfan)

### Descrição
A Baidu oferece a família de modelos ERNIE através da plataforma Qianfan. São modelos chineses de alta performance com forte suporte a idioma chinês e aplicações empresariais.

### Modelos Principais

#### ERNIE 5.0
- **Características:** Modelo flagship mais recente
- **Capacidades:** Raciocínio avançado, contexto longo
- **Uso:** Aplicações empresariais complexas

#### ERNIE 4.5 Turbo
- **Características:** Modelo rápido e econômico
- **Capacidades:** Respostas rápidas, contexto até 128K
- **Uso:** Aplicações em tempo real

#### ERNIE 4.5 Turbo VL
- **Características:** Modelo multimodal (visão)
- **Capacidades:** Análise de imagens e vídeo
- **Uso:** Aplicações visuais

### Estrutura de Preços (2026)

#### ERNIE 5.0 (Dólares - Internacional)

| Token Range | Input | Output |
|-------------|-------|--------|
| ≤32K | $1.40 | $5.60 |
| 32K-128K | $2.20 | $8.80 |

#### ERNIE 4.5 Turbo (Yuan - China)

| Modelo | Input (Yuan/K) | Output (Yuan/K) | Cache Hit |
|--------|----------------|-----------------|------------|
| ERNIE-4.5-Turbo-32K | ¥0.0008 | ¥0.0032 | ¥0.0002 |
| ERNIE-4.5-Turbo-128K | ¥0.0010 | ¥0.0040 | ¥0.0002 |

#### ERNIE 4.5 Turbo VL (Yuan - China)

| Modelo | Input (≤32K) | Output (≤32K) | Input (32K-128K) | Output (32K-128K) |
|--------|--------------|---------------|-----------------|-------------------|
| ERNIE-4.5-Turbo-VL | ¥0.003 | ¥0.032 | ¥0.006 | ¥0.064 |

### Descontos
- **Batch:** 40% de desconto em batch inference
- **Promoções:** Descontos sazonais disponíveis

### Links
- **Site:** https://cloud.baidu.com/product/qianfan
- **Pricing:** https://intl.cloud.baidu.com/zh/doc/qianfan/s/Jm8r1826a-intl

---

## 18. Zhipu AI (GLM)

### Descrição
A Zhipu AI (BigModel.cn) oferece a família de modelos GLM, incluindo modelos de texto, visão e código. É uma das principais plataformas de IA da China.

### Modelos Principais

#### GLM-5.3
- **Características:** Modelo flagship mais recente
- **Capacidades:** Raciocínio avançado, contexto até 1M
- **Uso:** Aplicações empresariais complexas

#### GLM-5.3-Flash
- **Características:** Modelo multimodal rápido
- **Capacidades:** Texto, imagem, vídeo, arquivo
- **Uso:** Aplicações multimodais

#### GLM-4.6V
- **Características:** Modelo de visão
- **Capacidades:** Análise de imagens
- **Uso:** Aplicações visuais

### Estrutura de Preços (2026)

#### GLM-5.3 (Yuan por 1M tokens)

| Modelo | Input | Output | Cache Hit | Contexto |
|--------|-------|--------|-----------|----------|
| GLM-5.3 | ¥8.00 | ¥28.00 | ¥2.00 | 1M |
| GLM-5.3-Flash | ¥0.80 | ¥2.80 | ¥0.23 | 1M |

#### GLM-4.6V (Yuan por 1M tokens)

| Modelo | Input (≤32K) | Output (≤32K) | Input (32K-128K) | Output (32K-128K) |
|--------|--------------|---------------|-----------------|-------------------|
| GLM-4.6V | ¥1.00 | ¥3.00 | ¥2.00 | ¥6.00 |
| GLM-4.6V-FlashX | ¥0.15 | ¥1.50 | ¥0.30 | ¥3.00 |

#### GLM Coding Plan (Assinatura)

| Plano | Preço | Features |
|-------|-------|----------|
| Lite | ¥94.4/mês | 10,000 pontos/sem, modelos básicos |
| Pro | ¥430.4/mês | 6x Lite, modelos premium, MCP tools |
| Ultra | ¥862.4/mês | 14x Lite,首发接入, recursos prioritários |

### Free Tier
- **GLM-4.7-Flash:** Input e output gratuitos (200K contexto)
- **GLM-4.6V-Flash:** Input e output gratuitos
- **Cache Storage:** Gratuito temporariamente na maioria dos modelos

### Links
- **Site:** https://www.bigmodel.cn
- **Pricing:** https://www.bigmodel.cn/pricing

---

## 19. xAI (Grok)

### Descrição
A xAI (SpaceXAI) é a empresa de IA de Elon Musk, oferece a família de modelos Grok. Conhecida pela velocidade, baixa taxa de alucinação e forte integração com o ecossistema X (Twitter).

### Modelos Principais

#### Grok 4.7
- **Características:** Modelo flagship mais recente
- **Capacidades:** Tool calling avançado, raciocínio configurável, baixa alucinação
- **Contexto:** 500K tokens
- **Uso:** Código, conhecimento geral, agentes

#### Grok 4.6
- **Características:** Versão anterior do flagship
- **Capacidades:** Tool calling, raciocínio
- **Contexto:** 500K tokens
- **Uso:** Aplicações gerais

#### Grok 4.5
- **Características:** Modelo estabelecido
- **Capacidades:** Raciocínio, código
- **Contexto:** 500K tokens
- **Uso:** Aplicações comerciais

#### Grok 4.20
- **Características:** Modelo de alta performance
- **Capacidades:** Velocidade líder de mercado, tool calling, aderência estrita a prompts
- **Contexto:** 1M tokens
- **Uso:** Aplicações em tempo real

#### Grok-build-0.1
- **Características:** Modelo para desenvolvimento
- **Capacidades:** Build e deploy
- **Contexto:** 256K tokens
- **Uso:** CI/CD, automação

### Estrutura de Preços (2026)

#### Grok 4.7 (Preços por 1M tokens)

| Contexto | Input | Cached | Output |
|----------|-------|--------|--------|
| Curto (<200K) | $2.00 | $0.50 | $6.00 |
| Longo (≥200K) | $4.00 | $1.00 | $12.00 |

#### Grok 4.6 / 4.5 (Preços por 1M tokens)

| Contexto | Input | Cached | Output |
|----------|-------|--------|--------|
| Curto (<200K) | $2.00 | $0.30/$0.50 | $6.00 |
| Longo (≥200K) | $4.00 | $0.60/$1.00 | $12.00 |

#### Grok 4.20 (Preços por 1M tokens)

| Contexto | Input | Cached | Output |
|----------|-------|--------|--------|
| Curto (<200K) | $1.25 | $0.20 | $2.50 |
| Longo (≥200K) | $2.50 | $0.40 | $5.00 |

#### Grok-build-0.1 (Preços por 1M tokens)

| Contexto | Input | Cached | Output |
|----------|-------|--------|--------|
| Curto (<200K) | $1.00 | $0.20 | $2.00 |
| Longo (≥200K) | $2.00 | $0.40 | $4.00 |

#### Grok 4.7 Fast (Cursor e Grok Build apenas)
- **Abaixo 200K:** Input $4.00, Cached $1.00, Output $12.00 por 1M tokens
- **Acima 200K:** Input $6.00, Cached $1.50, Output $18.00 por 1M tokens
- **Nota:** 2x o preço padrão, disponível apenas via Cursor e Grok Build

### Outros Modelos

#### Grok Voice
- **Preço:** $0.08 por minuto
- **Uso:** Transcrição e geração de áudio

#### Grok Imagine
- **Preço:** $15.00 por 1M caracteres (texto para imagem)
- **Imagens:** A partir de $0.02 por imagem
- **Uso:** Geração de imagens

### Planos de Assinatura

| Plano | Preço | Características |
|-------|-------|------------------|
| Free | $0/mês | Limites generosos, modelos básicos |
| SuperGrok | $30/mês | Grok 4.7, Grok Bot, Connectors, rate limits maiores, SOC 2 compliance |
| SuperGrok Plus | $100/mês | Tudo do SuperGrok + vídeo 1080p, uso significativamente maior, prioridade |
| SuperGrok Heavy | $300/mês | Tudo do SuperGrok Plus + uso máximo, velocidade máxima, suporte dedicado |
| Enterprise | Sob consulta | Rate limits customizados, infraestrutura dedicada, SSO, compliance |

### Links
- **Site:** https://x.ai
- **API:** https://x.ai/api
- **Docs:** https://docs.x.ai
- **Pricing:** https://x.ai/pricing

---

## 20. Grok Bot

### Descrição
O Grok Bot é um time de agentes de IA da xAI que trabalham em computadores na nuvem, fazem login em suas ferramentas e executam tarefas multi-step. Não tem preço standalone - vem incluído em planos do Cursor e SuperGrok.

### Características
- **Computador na nuvem:** Cada Bot tem seu próprio computador
- **Login em ferramentas:** Gmail, Salesforce, Zendesk, etc.
- **Execução autônoma:** Continua trabalhando mesmo com laptop fechado
- **Routines:** Aprende workflows de uma demonstração e executa automaticamente
- **Agendamento:** Executa tarefas em horários ou após eventos
- **Multi-bot:** Vários Bots podem rodar em paralelo
- **Handoff:** Bots podem passar trabalho entre si

### Como Funciona
1. **Você descreve a tarefa:** Mensageia o Bot como faria com um colega
2. **Bot executa:** Entra nas ferramentas, navega, clica, preenche formulários
3. **Aprovação:** Para em pontos críticos para sua aprovação
4. **Conclusão:** Termina a tarefa e reporta o resultado

### O Que Pode / Não Pode Fazer

| Capacidade | Pode? | Observações |
|------------|-------|-------------|
| Login em apps sem API | Sim | Você digita senhas, 2FA, CAPTCHAs |
| Trabalhar com laptop fechado | Sim | Roda na nuvem |
| Múltiplos Bots simultâneos | Sim | Cada Bot tem sua tela |
| Aprender workflow de demo | Sim | Grava até 10 minutos de passos |
| Executar em agendamento | Sim | Routines em horários/eventos |
| Isolar dados entre Bots | Não | Bots compartilham computador e arquivos |
| Bypassar CAPTCHAs | Não | Devolve para você |
| Fazer chamadas legais/financeiras | Não | Deve ter regras "Ask first" |

### Estrutura de Preços (2026)

**Nota:** Grok Bot não tem plano standalone. Incluído em planos elegíveis.

| Plano | Preço | Uso do Grok Bot |
|-------|-------|-----------------|
| Cursor Pro | $20/mês | Uso semanal, abaixo do Pro+ |
| Cursor Pro+ | $60/mês | Uso semanal generoso, abaixo do Ultra |
| Cursor Ultra | $200/mês | Maior uso semanal (igual ao SuperGrok Heavy) |
| SuperGrok (linked) | $30/mês | Uso vinculado, abaixo do Plus |
| SuperGrok Plus (linked) | $100/mês | Uso vinculado generoso, abaixo do Heavy |
| SuperGrok Heavy (linked) | $300/mês | Maior uso vinculado |
| Cursor Teams Standard | $40/seat/mês | Segue allowance do seat |
| Cursor Teams Premium | $120/seat/mês | Segue allowance do seat |
| Enterprise | Custom | Gerenciado pelo admin |

### Uso e Limites
- **Reset semanal:** Uso reinicia semanalmente
- **On-demand:** Uso extra cobrado por token/modelo se ativado
- **Free trial:** Crédito de uso com janela de 7 dias (não é plano free)
- **Planos não stack:** Se tem Cursor e SuperGrok, usa o allowance maior

### Links
- **Site:** https://x.ai/bot
- **Docs:** https://cursor.com/docs/grok-bot

---

## 21. Agent Harness

### Descrição
Um Agent Harness é a camada de software que transforma um modelo de linguagem em um agente capaz de realizar trabalho. Ele conecta o modelo ao contexto e ferramentas, coordena o loop do agente e mantém o estado da sessão.

### Como Funciona

#### Responsabilidades do Harness vs Modelo

| Responsabilidade | Modelo | Harness |
|------------------|--------|---------|
| Inferir intenção | ✅ | ❌ |
| Decompor tarefas | ✅ | ❌ |
| Escolher ferramentas | ✅ | ❌ |
| Interpretar outputs | ✅ | ❌ |
| Decidir quando parar | ✅ | ❌ |
| Assemblar request | ❌ | ✅ |
| Dispatch de ferramentas | ❌ | ✅ |
| Gerenciar contexto | ❌ | ✅ |
| Aplicar permissões | ❌ | ✅ |
| Gerenciar estado | ❌ | ✅ |
| Compaction | ❌ | ✅ |
| Extensões | ❌ | ✅ |

#### O Loop do Agente

Cada viagem ao redor do loop executa 6 passos em ordem:

1. **Assemblar o request:**
   - System prompt com regras e papel
   - Ferramentas disponíveis
   - Arquivos de instrução e memória
   - Conversação até agora

2. **Chamar o modelo:**
   - Modelo recebe o request
   - Retorna resposta ou solicitação de tool call

3. **Para tool request:**
   - Harness aplica regras de permissão
   - Rota a chamada para o ambiente
   - Captura o resultado

4. **Retornar ao modelo:**
   - Harness retorna resultado
   - Modelo decide: chamar outra tool, pedir input, ou terminar

5. **Associar ao estado:**
   - Mensagens, tool calls, resultados
   - Mudanças de código
   - Apresentar status na UI

6. **Decisão de turno:**
   - Chamar modelo novamente?
   - Compactar conversação?
   - Parar?

#### Seis Coisas que o Harness Decide

O modelo não pode decidir essas coisas por si mesmo:

1. **Turns:** Chamar modelo novamente, compactar, ou parar
2. **Tools:** Quais ações existem, como são descritas, resultados voltam
3. **Context:** O que vai em cada request, o que é dropado
4. **Permissions:** Quais calls rodam, quais pedem aprovação, quais são recusadas
5. **State:** O que sobrevive ao fim do request, sessão ou processo
6. **Extensions:** Onde ferramentas, skills e policies de terceiros se conectam

### Implementações

#### Microsoft Agent Framework Harness
- **Composição:** Usa blocos existentes do Agent Framework
- **Componentes:**
  - Chat client: conecta ao modelo
  - Chat pipeline: function invocation, message injection, history persistence, compaction
  - Agent/context providers: instruções, tools, memory, todo state, modes
  - Middleware/decorators: approval handling, observability, bounded looping
  - Application UX: streaming, progress display, input collection

#### VS Code Agent Harness
- **Coordenação:** Prepara requests, coordena tool calls e approvals
- **Retorno:** Captura resultados, retorna ao modelo
- **Associação:** Associa mensagens, tool calls, code changes à sessão
- **Apresentação:** Mostra status atual no VS Code

#### Google Antigravity Harness
- **Modelo:** Gemini 3.8 Flash
- **Subagents:** Delegação paralela de tarefas
- **Artifacts:** Rastreamento e verificação de outputs
- **Segurança:** Safe defaults, tool approval gates

### Links
- **VS Code Agent Harness:** https://code.visualstudio.com/docs/agents/concepts/agent-harnesses
- **Microsoft Agent Framework:** https://learn.microsoft.com/en-us/agent-framework/agents/harness
- **AI Engineering Playbook:** https://karthikreddy-7.github.io/ai-engineering-playbook/docs/05-agents/agent-harness
- **Berkeley Lecture:** https://scalable-ai.eecs.berkeley.edu/S2026/assets/lecture_slides/lecture_25.pdf

---

## 22. RAG (Retrieval-Augmented Generation)

### Descrição
RAG (Retrieval-Augmented Generation) é uma técnica que combina um sistema de recuperação com um modelo generativo. O sistema primeiro recupera documentos relevantes de um corpus usando busca vetorial, e então usa um modelo generativo para produzir texto baseado nos documentos recuperados.

### Como Funciona

#### Pipeline RAG Básico

1. **Ingestão de Dados:**
   - Documentos são carregados (PDF, TXT, HTML, etc.)
   - Texto é extraído e processado
   - Documentos são divididos em chunks (tipicamente 512-1024 tokens)
   - Chunks têm overlap (tipicamente 50-200 tokens) para manter contexto

2. **Embedding:**
   - Cada chunk é convertido em vetor usando embedding model
   - Vetores representam significado semântico
   - Modelos comuns: OpenAI text-embedding-3, SentenceTransformers, etc.

3. **Vector Store:**
   - Vetores são armazenados em banco de dados vetorial
   - Opções: Milvus, Pinecone, Weaviate, Chroma, FAISS, etc.
   - Índices são criados para busca eficiente (IVF, HNSW, GPU_CAGRA, etc.)

4. **Retrieval:**
   - Query do usuário é embedded no mesmo espaço
   - Busca semântica encontra chunks mais similares
   - Top-K chunks são recuperados (tipicamente 5-20)

5. **Reranking (opcional):**
   - Modelo de reranking reordena resultados por relevância
   - Melhora precisão dos chunks recuperados
   - Modelos: Cohere Rerank, Cross-Encoder, etc.

6. **Generation:**
   - Chunks recuperados são inseridos no prompt do LLM
   - LLM gera resposta baseada no contexto recuperado
   - Resposta é retornada ao usuário

### Configuração

#### Exemplo de Configuração YAML (NVIDIA RAG)

```yaml
# Vector Store Configuration
vector_store:
  name: "milvus"
  url: "http://localhost:19530"
  index_type: "GPU_CAGRA"
  search_type: "dense"
  enable_gpu_index: true
  enable_gpu_search: true
  default_collection_name: "my_rag_collection"

# NV-Ingest Configuration
nv_ingest:
  message_client_hostname: "localhost"
  message_client_port: 7670
  extract_text: true
  extract_tables: true
  extract_charts: true
  chunk_size: 512
  chunk_overlap: 150

# LLM Configuration
llm:
  server_url: "http://localhost:8999"
  model_name: "meta/llama-3.1-70b-instruct"
  temperature: 0.7
  max_tokens: 2048
```

#### Exemplo de Configuração Python (Mini RAG)

```python
from mini import AgenticRAG, LLMConfig, RetrievalConfig

# Configure LLM
llm_config = LLMConfig(
    model="gpt-4o-mini",
    api_key="your-api-key",
    temperature=0.7,
    timeout=60.0,
    max_retries=3
)

# Configure retrieval
retrieval_config = RetrievalConfig(
    top_k=10,              # Recuperar 10 chunks inicialmente
    rerank_top_k=3,        # Manter 3 após reranking
    similarity_threshold=0.7
)

# Create RAG instance
rag = AgenticRAG(
    vector_store=vector_store,
    embedding_model=embedding_model,
    llm_config=llm_config,
    retrieval_config=retrieval_config
)
```

#### Exemplo com Milvus

```python
from pymilvus import MilvusClient

# Create client
milvus_client = MilvusClient(uri="./milvus_demo.db")
collection_name = "my_rag_collection"

# Create collection
if milvus_client.has_collection(collection_name):
    milvus_client.drop_collection(collection_name)

milvus_client.create_collection(
    collection_name=collection_name,
    dimension=768,  # Match embedding model dimension
)

# Insert documents
for doc in documents:
    embedding = embedding_model.encode(doc["text"])
    milvus_client.insert(
        collection_name=collection_name,
        data={
            "id": doc["id"],
            "vector": embedding,
            "text": doc["text"],
            "metadata": doc["metadata"]
        }
    )

# Search
query_embedding = embedding_model.encode(query)
results = milvus_client.search(
    collection_name=collection_name,
    data=[query_embedding],
    limit=5,
    output_fields=["text", "metadata"]
)
```

### Componentes Principais

#### Vector Stores
- **Milvus:** Open-source, escalável, suporta GPU
- **Pinecone:** Managed, fácil de usar, escalável
- **Weaviate:** Open-source, multimodal, GraphQL API
- **Chroma:** Open-source, simples, local-first
- **FAISS:** Open-source, Facebook, pure Python/C++

#### Embedding Models
- **OpenAI:** text-embedding-3-small ($0.02/M), text-embedding-3-large ($0.13/M)
- **Cohere:** embed-english-v3.0, embed-multilingual-v3.0
- **SentenceTransformers:** all-MiniLM-L6-v2, all-mpnet-base-v2 (open-source)
- **HuggingFace:** MTEB leaderboard para comparação

#### Reranking Models
- **Cohere:** rerank-english-v3.0, rerank-multilingual-v3.0
- **Cross-Encoder:** ms-marco-MiniLM-L-6-v2
- **BGE:** bge-reranker-base, bge-reranker-large

### Links
- **NVIDIA RAG Blueprint:** https://github.com/NVIDIA-AI-Blueprints/rag
- **Milvus Bootcamp:** https://github.com/milvus-io/bootcamp
- **Haystack Tutorials:** https://github.com/deepset-ai/haystack-tutorials
- **Mini RAG:** https://vivek-78ace06c.mintlify.app/guides/configuration

---

## 23. JEV AI (TypeSafe AI)

### Descrição
JEV (System One) é um modelo de avaliação da TypeSafe AI que classifica, roteia e pontua estado estruturado. Diferente de modelos de chat, JEV não gera texto - retorna escolhas, scores e probabilidades booleanas.

### Como Funciona

#### Conceito Básico
- **Input:** `state` (o que olhar) + `questions` (o que decidir)
- **Output:** Respostas tipadas com probabilidades
- **Não é chat:** Não aceita prompt ou retorna texto
- **Zero prose:** Retorna apenas dados estruturados

#### Tipos de Perguntas

| Tipo | O que faz | Critério | Campos de resposta | Limites |
|------|------------|----------|-------------------|---------|
| `choice` | Escolhe uma opção de um conjunto | Map de opções para descrições | `choice`, `probabilities` | Até 255 opções |
| `score` | Avalia estado contra rubrica ordenada | Array de níveis (menor → maior) | `score`, `probabilities` | 2-10 níveis |
| `boolean` | Estima se statement é true | Descrições opcionais true/false | `probability` | Nenhum |
| `noul` | Yes/No/NoIdea | Descrições yes/no | `choice`, `confidence` | Nenhum |

#### Exemplo de Uso (TypeScript com AI SDK)

```typescript
import { experimental_decide } from 'ai';

const result = await experimental_decide({
  model: 'typesafe-ai/jev',
  state: {
    subject: ticket.subject,
    message: ticket.message,
    customerTier: ticket.customerTier,
  },
  questions: [
    {
      type: 'choice',
      question: 'Which team should handle this ticket?',
      choices: {
        billing: 'Charges, invoices, and refunds',
        technical: 'Bugs, outages, and integrations',
        other: 'None of the other options apply',
      },
    },
    {
      type: 'score',
      question: 'How urgent is this ticket?',
      levels: [
        'Low urgency - can wait days',
        'Medium urgency - should be addressed within 24h',
        'High urgency - needs immediate attention',
      ],
    },
    {
      type: 'boolean',
      question: 'Is this a security issue?',
    },
  ],
});

console.log(result.choices[0].choice); // 'billing', 'technical', or 'other'
console.log(result.choices[0].probabilities); // { billing: 0.85, technical: 0.10, other: 0.05 }
console.log(result.scores[0].score); // 0, 1, or 2
console.log(result.booleans[0].probability); // 0.0 to 1.0
```

### Configuração

#### Variáveis de Ambiente (.env)

```bash
# Para TypeSafe API direta
TYPESAFE_API_KEY=your-typesafe-api-key
TYPESAFE_BASE_URL=https://api.typesafe.ai

# Para OpenRouter
OPENAI_API_KEY=your-openrouter-key
OPENAI_BASE_URL=https://openrouter.ai/api/v1
JEV_MODEL=~typesafe/jev-latest

# Para Vercel AI Gateway
VERCEL_OIDC_TOKEN=your-vercel-oidc-token
```

#### Configuração Python

```python
import os
from dotenv import load_dotenv

load_dotenv()

# Configuração básica
config = {
    "OPENAI_API_KEY": os.getenv("OPENAI_API_KEY"),
    "OPENAI_BASE_URL": "https://openrouter.ai/api/v1",
    "MODEL": "openai/gpt-6-luna",  # LLM para tool calling
    "SMART_MODEL": "openai/gpt-6-sol",  # Para routing/benchmarks
    "JEV_BACKEND": "typesafe",  # ou "adapter" para fallback sem JEV
    "JEV_MODEL": "~typesafe/jev-latest",  # ~ sempre aponta para latest
    "TYPESAFE_BASE_URL": "https://openrouter.ai/api",
    "TYPESAFE_API_KEY": os.getenv("OPENAI_API_KEY"),
}
```

#### Configuração TypeScript (Jevlish)

```typescript
import { configure } from 'jevlish';

configure({
  apiKey: process.env.TYPESAFE_API_KEY,
  model: 'jev-1.13',  // default: jev-latest
  policy: {
    noul: {
      yesAbove: 0.9,  // default: 0.8
      noBelow: 0.05,  // default: 0.2
    },
  },
});
```

### Endpoints de API

| Rota | Endpoint | Model ID | Key | Tipo yes/no |
|------|----------|-----------|-----|-------------|
| TypeSafe API | POST api.typesafe.ai/v1/systemone | jev-latest / jev-1.13.0 | TypeSafe key | noul |
| Vercel AI Gateway | POST ai-gateway.vercel.sh/v1/evaluate | typesafe-ai/jev | Vercel OIDC token | boolean |
| OpenRouter | POST openrouter.ai/api/v1/systemone | typesafe/jev-1.13 | OpenRouter key | noul |
| Cloudflare Workers | env.AI.run('typesafe/jev') | typesafe/jev | Worker binding | noul |

### Especificações

| Propriedade | Valor |
|-------------|-------|
| Model ID | typesafe-ai/jev |
| Model type | Evaluation |
| Context window | 64K tokens por request (32K para state) |
| Output token charge | None (input tokens only) |
| Pricing | $0.042 por 1M input tokens |
| Data controls | Zero Data Retention, No Training (per request) |
| Observability | AI Gateway logs, custom reporting, budgets |

### Links
- **TypeSafe AI:** https://typesafe.ai
- **Jev Tools:** https://jevai.tools
- **Vercel Guide:** https://vercel.com/kb/guide/typesafe-jev-and-ai-sdk
- **Jevlish:** https://jacobgoldfarb.github.io/Jevlish
- **Learn Jev:** https://harshithsunku.github.io/learn-jev-end-to-end

---

## 20. MiniMax AI

### Descrição
A MiniMax AI é uma plataforma chinesa que oferece modelos de IA de alta performance para texto, imagem, áudio e vídeo. Conhecida pelos modelos M3 e M2 com contexto longo e capacidades multimodais.

### Modelos Principais

#### MiniMax-M3
- **Características:** Modelo flagship mais recente
- **Capacidades:** Contexto até 512K tokens, multimodal, raciocínio avançado
- **Uso:** Aplicações complexas, documentos longos, vídeo
- **Contexto:** 512K tokens (padrão), até 1M em alguns casos

#### MiniMax-M3.1 Flash Preview
- **Características:** Versão rápida do M3
- **Capacidades:** Respostas rápidas, multimodal
- **Uso:** Aplicações em tempo real, prototipagem

#### MiniMax-M2.7
- **Características:** Versão estabelecida
- **Capacidades:** Tarefas gerais de IA, código
- **Uso:** Aplicações comerciais

#### MiniMax-M2.7-highspeed
- **Características:** Versão de alta velocidade
- **Capacidades:** Respostas muito rápidas
- **Uso:** Aplicações em tempo real

#### MiniMax-M2.5 / M2.1 / M2
- **Características:** Versões anteriores
- **Capacidades:** Tarefas gerais
- **Uso:** Aplicações estabelecidas

#### H3 (Video)
- **Características:** Modelo de geração de vídeo
- **Capacidades:** Criação de vídeos a partir de texto
- **Uso:** Marketing, conteúdo multimídia

### Estrutura de Preços (2026)

#### MiniMax-M3 (Padrão - 50% off permanente)

| Contexto | Input | Output | Cache Read |
|----------|-------|--------|------------|
| ≤512K tokens | $0.30 | $1.20 | $0.06 |
| >512K tokens | $0.60 | $2.40 | $0.12 |

#### MiniMax-M3 (Priority - 1.5x padrão)

| Contexto | Input | Output | Cache Read |
|----------|-------|--------|------------|
| ≤512K tokens | $0.45 | $1.80 | $0.09 |
| >512K tokens | $0.90 | $3.60 | $0.18 |

#### MiniMax-M2.7

| Modelo | Input | Output | Cache Read | Cache Write |
|--------|-------|--------|------------|-------------|
| M2.7 | $0.30 | $1.20 | $0.06 | $0.375 |
| M2.7-highspeed | $0.60 | $2.40 | $0.06 | $0.375 |

#### MiniMax-M2.5 / M2.1 / M2

| Modelo | Input | Output | Cache Read | Cache Write |
|--------|-------|--------|------------|-------------|
| M2.5 / M2.1 / M2 | $0.30 | $1.20 | $0.03 | $0.375 |
| M2.5-highspeed / M2.1-highspeed | $0.60 | $2.40 | $0.03 | $0.375 |

### Planos de Assinatura

#### Token Plan (Individuais)

| Plano | Preço | Melhor Para | Agentes | Quota |
|-------|-------|-------------|---------|-------|
| Plus | $22/mês | Projetos pessoais e prototipagem | 3-4 agentes | ~1.7B tokens/mês |
| Max | $55/mês | Coding diário com agentes e multimodal | 4-5 agentes | ~5.1B tokens/mês |
| Ultra | $132/mês | Workflows pesados de agentes | 6-7 agentes | ~10B tokens/mês |

#### M Plan (Individuais)

| Tier | Preço | Modelo de Texto | Modelo de Vídeo | Uso Relativo |
|------|-------|-----------------|-----------------|---------------|
| Go | - | M3.1 Flash Preview | Não incluído | 1x |
| Explore | - | M3.1 Flash Preview | H3 | 3x |
| Build | - | M3.1 Flash Preview | H3 | 7.5x |

#### Speech Recognition (Audio-to-Text)
- **Preço:** Variável por uso
- **Streaming:** Suportado
- **Speaker Diarization:** Disponível

#### Hailuo 2.3 Video Generation
- **Plano Max:** 3 clips/dia
- **Plano Ultra:** 5 clips/dia

### Recursos Adicionais

#### Credits (Pré-pago)
| Preço | Credits |
|-------|---------|
| $5 | 5,000 credits |
| $25 | 25,000 credits |
| $100 | 100,000 credits |

- **Conversão:** 1,000 credits = $1
- **Uso:** Credits cobram os mesmos recursos que Token Plan

#### Context Window
- **MiniMax-M3:** 1M tokens
- **MiniMax-M2.7:** 1M tokens
- **Built for:** Documentos longos e grandes codebases

#### Multimodal
- **Entendimento nativo:** Imagem e vídeo input
- **Geração de imagem:** ✓ em todos os planos
- **Geração de voz:** ✓ em todos os planos
- **Geração de vídeo:** ✗ Go, ✓ Explore/Max (3/dia), ✓ Build/Ultra (5/dia)

### Links
- **Site:** https://platform.minimax.io
- **Download:** https://agent.minimax.io/download
- **Pricing:** https://platform.minimax.io/docs/pricing/overview
- **Docs:** https://platform.minimax.io/docs

---

## 21. Moonshot AI (Kimi)

### Descrição
A Moonshot AI oferece a plataforma Kimi com modelos de geração e raciocínio avançado. Conhecida pelo contexto longo e capacidade de processar documentos extensos.

### Modelos Principais

#### Kimi K2.6
- **Características:** Modelo mais recente
- **Capacidades:** Contexto 262K tokens, thinking mode
- **Uso:** Aplicações complexas, documentos longos

#### Kimi K2.5
- **Características:** Versão anterior
- **Capacidades:** Contexto 262K tokens, thinking mode
- **Uso:** Aplicações gerais

#### Moonshot-v1
- **Características:** Série clássica
- **Capacidades:** Contexto 8K, 32K ou 128K
- **Uso:** Aplicações estabelecidas

### Estrutura de Preços (2026)

#### Kimi K2.6 (Yuan por 1M tokens)

| Item | Preço |
|------|-------|
| Contexto | 262,144 tokens |
| Input (cache hit) | ¥1.10 |
| Input (cache miss) | ¥6.50 |
| Output | ¥27.00 |

#### Kimi K2.5 (Yuan por 1M tokens)

| Item | Preço |
|------|-------|
| Contexto | 262,144 tokens |
| Input (cache hit) | ¥0.70 |
| Input (cache miss) | ¥4.00 |
| Output | ¥21.00 |

#### Moonshot-v1 (Yuan por 1M tokens)

| Modelo | Contexto | Input | Output |
|--------|----------|-------|--------|
| moonshot-v1-8k | 8,192 | ¥2.00 | ¥10.00 |
| moonshot-v1-32k | 32,768 | ¥5.00 | ¥20.00 |
| moonshot-v1-128k | 131,072 | ¥10.00 | ¥30.00 |

#### Batch API
- **Desconto:** 60% do preço padrão para todos os modelos
- **K2.6 Batch:** Input ¥3.90, Output ¥16.20 por 1M tokens
- **K2.5 Batch:** Input ¥2.40, Output ¥12.60 por 1M tokens

#### Web Search
- **Custo:** ¥0.03 por chamada da ferramenta $web_search

### Links
- **Site:** https://www.moonshot.cn
- **Docs:** https://moonshot-ai.gitbook.io/moonshot-ai
- **Pricing:** https://platform.kimi.com/docs/pricing

---

## Comparativo de Custos (Estimativa por 1M Tokens)

| Plataforma | Modelo | Input | Output | Total (50/50) |
|------------|--------|-------|--------|---------------|
| OpenAI | GPT-4o | $2.50 | $10.00 | $6.25 |
| OpenAI | GPT-4o Mini | $0.15 | $0.60 | $0.375 |
| OpenAI | GPT-3.5 Turbo | $0.50 | $1.50 | $1.00 |
| Anthropic | Claude 3.5 Sonnet | $3.00 | $15.00 | $9.00 |
| Anthropic | Claude 3.5 Haiku | $0.80 | $4.00 | $2.40 |
| Anthropic | Claude 3 Haiku | $0.25 | $1.25 | $0.75 |
| Google | Gemini 1.5 Pro | $1.25 | $5.00 | $3.125 |
| Google | Gemini 1.5 Flash | $0.075 | $0.30 | $0.1875 |
| Meta | Llama 3.1 70B (hospedado) | ~$1.50 | ~$2.00 | ~$1.75 |
| Meta | Llama 3.1 8B (hospedado) | ~$0.15 | ~$0.20 | ~$0.175 |
| Mistral | Mistral Large | $4.00 | $12.00 | $8.00 |
| Mistral | Mistral Small | $0.20 | $0.60 | $0.40 |
| Cohere | Command R | $0.50 | $1.50 | $1.00 |
| DeepSeek | DeepSeek-V4 Flash | $0.14 | $0.28 | $0.21 |
| DeepSeek | DeepSeek-V4 Pro | $1.69 | $3.38 | $2.535 |
| Alibaba | Qwen-Plus | $0.276 | $1.101 | $0.6885 |
| Alibaba | Qwen-Max | $1.65 | $4.951 | $3.3005 |
| Baidu | ERNIE 4.5 Turbo | ~$0.11 | ~$0.44 | ~$0.275 |
| Zhipu | GLM-5.3-Flash | ~$0.11 | ~$0.39 | ~$0.25 |
| Moonshot | Kimi K2.5 | ~$0.56 | ~$2.94 | ~$1.75 |
| MiniMax | M3 (≤512K) | $0.30 | $1.20 | $0.75 |
| MiniMax | M2.7 | $0.30 | $1.20 | $0.75 |
| xAI | Grok 4.7 (curto) | $2.00 | $6.00 | $4.00 |
| xAI | Grok 4.20 (curto) | $1.25 | $2.50 | $1.875 |
| JEV AI | jev-latest | $0.042 | $0.00 | $0.021 |

**Nota:** Preços chineses convertidos de Yuan para Dólar (aproximadamente ¥1 = $0.14). Preços podem variar por região e promoções. JEV AI cobra apenas input tokens.

---

## Considerações para Escolha

### Custo-benefício
- **Mais econômicos:** Gemini 1.5 Flash, Llama 3.1 8B, DeepSeek
- **Melhor performance:** GPT-4o, Claude 3.5 Sonnet, Gemini 1.5 Pro
- **Equilíbrio:** GPT-4o Mini, Claude 3.5 Haiku, Mistral Small

### Casos de Uso

#### Aplicações de Chat
- **Recomendado:** GPT-4o Mini, Claude 3.5 Haiku, Gemini 1.5 Flash
- **Custo:** $0.20-0.40 por 1M tokens

#### Análise de Código
- **Recomendado:** GPT-4o, Claude 3.5 Sonnet, Codestral
- **Custo:** $2.50-15.00 por 1M tokens

#### Processamento de Documentos
- **Recomendado:** Claude 3.5 Sonnet, Gemini 1.5 Pro, GPT-4 Turbo
- **Custo:** $3.00-10.00 por 1M tokens

#### Aplicações em Tempo Real
- **Recomendado:** Gemini 1.5 Flash, Claude 3.5 Haiku, Llama 3.1 8B
- **Custo:** $0.075-0.80 por 1M tokens

#### Deploy Próprio (Privacidade)
- **Recomendado:** Llama 3.1, Mixtral
- **Custo:** Infraestrutura própria + energia

---

## Links Úteis

### Plataformas Ocidentais
- **OpenAI:** https://platform.openai.com/docs
- **Anthropic:** https://docs.anthropic.com
- **Google AI:** https://ai.google.dev/docs
- **Meta Llama:** https://llama.meta.com
- **Mistral AI:** https://docs.mistral.ai
- **Cohere:** https://docs.cohere.com
- **Perplexity:** https://docs.perplexity.ai
- **DeepSeek:** https://platform.deepseek.com

### Plataformas de Desenvolvimento (Dev Tools)
- **Verdent AI:** https://www.verdent.ai
- **Devin AI:** https://devin.ai
- **Cursor:** https://cursor.com
- **Kiro.dev:** https://kiro.dev
- **Google Antigravity:** https://antigravity.google
- **Claude Code:** https://claude.com/product/claude-code
- **OpenAI Codex:** https://chatgpt.com/codex

### Plataformas Chinesas
- **Alibaba Qwen:** https://www.alibabacloud.com/product/model-studio
- **Baidu Qianfan (ERNIE):** https://cloud.baidu.com/product/qianfan
- **Zhipu AI (GLM):** https://www.bigmodel.cn
- **Moonshot AI (Kimi):** https://www.moonshot.cn
- **MiniMax AI:** https://platform.minimax.io

---

## 24. Ferramentas e Recursos para IA

### 📚 Plataformas para Criar Skills

#### Omniroute
- **Site:** https://www.omniroute.online/pt-BR/#features
- **Descrição:** Plataforma para criar roteiros e workflows inteligentes com IA
- **Características:** 
  - Construtor visual de workflows
  - Integração com múltiplas IAs
  - Automação de processos
- **Casos de Uso:** Automação de negócios, workflows de atendimento, processos repetitivos
- **Preço:** Sob consulta

#### book-to-skill
- **Repository:** https://github.com/virgiliojr94/book-to-skill
- **Descrição:** Ferramenta open-source para transformar conteúdo de livros em skills
- **Características:** 
  - Conversão automática de texto em estrutura de skill
  - Suporte a múltiplos formatos
  - Integração com GitHub
- **Casos de Uso:** Criar skills educacionais, converter documentação em skills
- **Preço:** Gratuito (open-source)

#### rea.tools
- **Site:** https://rea.tools/pt-BR/
- **Descrição:** Plataforma de automação com IA para criação de workflows
- **Características:** 
  - Designer visual de automações
  - Suporte a APIs e integrações
  - Agendamento de tarefas
- **Casos de Uso:** Marketing automation, integração de sistemas, processamento de dados
- **Preço:** Planos a partir de USD 29/mês

---

### 🤖 10 Principais Skills para Claude

#### 1️⃣ Ponytail
- **Descrição:** Torna o código Claude mais preguiçoso (lazy) como um senior dev experiente — escreve menos, reutiliza mais
- **Características:**
  - Detecção automática de padrões de reutilização
  - Sugestões de abstrações
  - Otimização de código existente
- **Casos de Uso:** Refatoração, redução de duplicação, código limpo
- **Como Usar:** Ativar no início da sessão para optimizar escrita de código
- **Link:** Integrado em Claude Code

#### 2️⃣ Matt Pocock Skills
- **Descrição:** 25+ workflows de senior engineer cobrindo engenharia e produtividade
- **Características:**
  - TDD (Test-Driven Development)
  - Code review estruturado
  - Arquitetura de software
  - Handoffs e documentação
  - TypeScript advanced patterns
- **Casos de Uso:** Desenvolvimento profissional, reviews, planejamento arquitetural
- **Link:** Integrado em Claude

#### 3️⃣ I Have ADHD
- **Descrição:** Torna Claude aberto com o próximo passo, usa instruções numeradas e elimina fluff
- **Características:**
  - Respostas estruturadas e diretas
  - Instruções claras e numeradas
  - Foco em ação
  - Eliminação de texto desnecessário
- **Casos de Uso:** Tarefas com deficit de atenção, workflows rápidos, comunicação clara
- **Como Usar:** Mencionar "use I Have ADHD mode" para ativar

#### 4️⃣ Security Audit Skill (Cloudflare)
- **Descrição:** Transforma Claude em auditor de segurança com verificações validadas
- **Características:**
  - Análise de vulnerabilidades (OWASP Top 10)
  - Detecção de exposição de credenciais
  - Verificação de integridade
  - Relatórios estruturados
- **Casos de Uso:** Code review de segurança, análise de vulnerabilidades, compliance
- **Link:** https://github.com/cloudflare/security-audit-skill

#### 5️⃣ Superpowers
- **Descrição:** Workflow dev completo — brainstorming, TDD, code review, git, handoffs
- **Características:**
  - Brainstorming estruturado
  - Test-Driven Development
  - Verificação de código
  - Fluxo Git assistido
  - Planejamento de arquitetura
- **Casos de Uso:** Projetos completos, workflows profissionais, desenvolvimento agnóstico
- **Como Usar:** `/brainstorm`, `/test-driven`, `/code-review`, etc.

#### 6️⃣ Diagram Design
- **Descrição:** Produz diagramas limpos e on-brand (arquitetura, fluxos, mockups)
- **Características:**
  - Diagramas em HTML/SVG
  - Design system integrado
  - Temas customizáveis
  - Flowcharts e arquitetura
- **Casos de Uso:** Documentação visual, apresentações, arquitetura de sistemas
- **Suporte:** Mermaid, PlantUML, SVG customizado

#### 7️⃣ Humanizer
- **Descrição:** Reescreve texto gerado por IA para parecer escrito por um humano
- **Características:**
  - Remoção de padrões "AI-sounding"
  - Aumento de naturalidade
  - Preservação de conteúdo
  - Ajuste de tom
- **Casos de Uso:** Redação, marketing, comunicação profissional
- **Como Usar:** Colar texto gerado e pedir para humanizar

#### 8️⃣ Graphify
- **Descrição:** Converte codebase, docs e schemas em knowledge graph queryável
- **Características:**
  - Análise automática de codebase
  - Extração de relações
  - Queries de relações
  - Visualização de dependências
- **Casos de Uso:** Onboarding, refatoração, análise de impacto, documentação
- **Instalação:** `/graphify` no Claude Code

#### 9️⃣ Addy Osmani Skills
- **Descrição:** 25 workflows de senior engineer (Addy Osmani) — specs, performance, deployment
- **Características:**
  - Web Performance
  - Core Web Vitals
  - Loading strategies
  - Image optimization
  - CSS/JS optimization
- **Casos de Uso:** Otimização web, performance, arquitetura frontend
- **Foco:** Performance, escalabilidade, user experience

#### 🔟 Impeccable
- **Descrição:** Dá design taste ao Claude para que frontend pare de parecer gerado por IA
- **Características:**
  - Design system awareness
  - Componentes estilizados
  - Tipografia profissional
  - Layouts modernos
  - Acessibilidade
- **Casos de Uso:** UI/UX, componentes frontend, design visual
- **Como Usar:** Ativar ao criar componentes React/Vue/HTML

---

### 📊 Recursos Adicionais

#### Skill Board
- **Site:** https://www.skillleaderboard.com/
- **Descrição:** Leaderboard e marketplace de skills de IA — descobre e compartilha skills
- **Características:**
  - Ranking de skills por relevância
  - Reviews da comunidade
  - Estatísticas de uso
  - Filtro por categoria
- **Casos de Uso:** Descobrir novos skills, compartilhar criações, análise de tendências
- **Preço:** Gratuito

#### Foreman (Revisor de IA)
- **Site:** https://www.withforeman.com/
- **Descrição:** Plataforma para revisar e auditar outputs de IA
- **Características:**
  - Reviews estruturados
  - Colaboração em time
  - Métricas de qualidade
  - Feedback automático
- **Casos de Uso:** QA de conteúdo IA, validação de outputs, compliance
- **Preço:** Sob consulta

#### MinerU (Conversor PDF → Markdown)
- **Repository:** https://github.com/opendatalab/mineru
- **Descrição:** Ferramenta open-source para converter PDFs em Markdown de alta qualidade
- **Características:**
  - Preservação de layout
  - Extração de tabelas
  - OCR integrado
  - Suporte a múltiplos idiomas
- **Casos de Uso:** Processamento de documentos, ingestão de dados, RAG
- **Preço:** Gratuito (open-source)
- **Instalação:** `pip install pdf2md` ou via GitHub

---

### 🔗 Links de Referência

**Comunidades e Recursos:**
- Skill Board (Leaderboard): https://www.skillleaderboard.com/
- GitHub Awesome Skills: https://github.com/topics/ai-skill
- Claude Community: https://claude.ai/

**Documentação:**
- Claude API: https://docs.anthropic.com
- Claude Code: https://claude.com/product/claude-code
- Skill Creation Guide: https://docs.anthropic.com/en/docs/guides/building-agent-systems

**Ferramentas Correlatas:**
- VS Code Extensions: https://marketplace.visualstudio.com/VSCode
- JetBrains AI Assistant: https://www.jetbrains.com/ai/
- GitHub Copilot: https://github.com/features/copilot

---

## 📌 Resumo: Quando Usar Cada Ferramenta

| Objetivo | Ferramenta Recomendada | Por Quê |
|----------|----------------------|---------|
| **Criar Skills** | Omniroute ou book-to-skill | Construção visual e conversão automática |
| **Código limpo** | Ponytail | Reduz duplicação, melhora reutilização |
| **TDD/Code Review** | Superpowers ou Matt Pocock | Workflows estruturados e profissionais |
| **Segurança** | Security Audit (Cloudflare) | Análise validada de vulnerabilidades |
| **Design/UI** | Impeccable | Parar de parecer IA-gerado |
| **Diagramas** | Diagram Design | Arquitetura e fluxos visuais |
| **Análise Codebase** | Graphify | Entender relações e dependências |
| **Performance Web** | Addy Osmani Skills | Core Web Vitals e otimização |
| **Humanizar texto** | Humanizer | Reescrever para parecer natural |
| **Processar PDFs** | MinerU | Converter documentos para Markdown |
| **Descobrir Skills** | Skill Board | Encontrar novas ferramentas |
| **QA de IA** | Foreman | Validar qualidade de outputs |

---

**Última Atualização:** Outubro 2026
