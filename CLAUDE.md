# CLAUDE.md — OSM AI Coach Pro

Guia para sessões futuras. Documenta só o que foi confirmado no código/CI. Se algo aqui ficar velho, corrija o arquivo
junto com a mudança. Não repita análises já registradas aqui.

## Como responder ao usuário
- Português do Brasil, resultado primeiro, curto (o usuário lê no celular). Sem logs longos nem arquivos inteiros.
- Dizer claramente o que foi validado e o que não foi (ex.: avisos com o app fechado não dá para testar no servidor).
- Pronome neutro (they/them) se precisar falar de terceiros sem pronome informado.

## O que é
App **Android nativo** (Kotlin, Jetpack Compose) que lê, por captura de tela + OCR, as telas do jogo **OSM (Online Soccer
Manager)** em até **4 slots** (4 times/ligas ao mesmo tempo) e devolve táticas, dicas, avisos e aprendizado.
Objetivo do usuário: ganhar e evoluir rápido **sem gastar Boss Coins (BC)**.
Código ativo: `osm-coach/` (applicationId `com.osmaicoach.collector`, minSdk 30, target/compile 35, Java 17).

## Estrutura (só o que importa)
- `osm-coach/app/src/main/java/com/osmaicoach/collector/` — todo o app (pacote único, ~20 mil linhas):
  - Captura/leitura: `CaptureService` (acessibilidade + overlay/bolha + loop de captura), `Pipeline` (OCR ML Kit →
    `ScreenClassifier`/`Screens.classify` → `Parsers`/`Screens` → `Repo.apply`), `SlotStateMachine` (`SlotMatcher`:
    casa o time lido com um slot; **não inventa** slot), `PixelProbe` (sondas de cor), `Models` (`ScreenType`, `Extraction`, `Txt`).
  - Dados: `Db` (Room `osm_coach.db`, **version = 1, exportSchema=false, sem migrações**), `Repo` (regras de gravação,
    `apply`, `applyExtra`, `noteScreen`, timers, dedupe do elenco), `Merge` (fusão de campos).
  - Decisão: `Engine` (`TacticEngine`, `Formations`), `Intel` (`WinModel` Poisson, `Fixtures`, `Evidence`, `Coach`),
    `Learn` (`Learned`, regressão sobre gols reais), `Director` (validadores, geração de tática/mercado), `Smart`
    (`OsmEvents`, `SellPrices`, `Sponsors`, `TrainLearn`, `RivalPredict`), `Playbook` (dicas), `Hints` (bolha/Diretor),
    `Fresh` ("telas para atualizar": só pede o que muda uma decisão — calendário só sem jogo conhecido, preparação ≤3 h do jogo,
    Médico/Advogado só após um jogo), `Screens` (leitores das telas novas), `Progress` (inclui `Accuracy`: % de acerto da previsão V/E/D
    contra o resultado real, com dicas), `RivalWatch`.
  - Avisos: `Notifier` (alarmes locais) + `Push` (reserva na nuvem via ntfy.sh, opt-in em Ajustes: agenda cada aviso no
    servidor com `sequence_id` fixo; cancela quando o alarme local toca) + `CalendarSync` (reserva: lembretes num calendário local
    "OSM Coach avisos", tocados pelo app Calendário do sistema; opt-in com permissão) + `KeepAliveService` (monitor em primeiro plano,
    confere alarmes a cada minuto). Diagnóstico em Ajustes: log de eventos de aviso (`Notifier.fireLog`) e status do `Push`; botão para a Inicialização automática da ASUS/ROG.
  - IA: `Ai.kt` (`Settings`, `AiClient`, `Processor`, `MetaRefresh`): Gemini, Groq/compatível, OpenRouter, Mistral, Claude.
    Chaves ficam em SharedPreferences `settings` (nunca no código/repositório).
  - UI/avisos: `MainActivity` (5 mil linhas; abas Hoje, Sessões, Slots, Diretor, Ajustes), `OsmUi`, `Illustrations`,
    `EvolutionUi`, `Notifier` (alarmes/notificações), `Export` (diagnóstico JSON), `Health`, `Runtime` (`AppScope`, `Diag`).
- `osm-coach/app/src/test/java/com/osmaicoach/collector/` — ~30 arquivos de teste JUnit; `Fx.kt` tem os fixtures
  (`Fx.line`, `Fx.ocr`) para simular OCR.
- `.github/workflows/android-native.yml` — CI do app ativo.
- **Legado (não é o app ativo; não mexer sem pedido):** raiz web/PWA (`index.html`, `app.js`, `src/`, `api/`, `lib/`,
  `vercel.json`, `tests/`, `package.json` com `npm run build|test|check`), `android-collector/` (app Android antigo, só
  compila em `android-build.yml` no branch `android-collector-v1` ou manual), `SlotNavigationTracker.V25/V26.kt`,
  `apply_native_current.py`, `github/`. O estado atual da parte web/Vercel **não foi verificado**.

## Comandos (rodar dentro de `osm-coach/`)
- Não há `gradlew`; usa-se `gradle` (CI: 8.9). Validação completa local:
  `gradle --no-daemon -q --max-workers=2 :app:testDebugUnitTest :app:lintDebug :app:assembleDebug`
- O daemon do Gradle às vezes cai no ambiente remoto: **rode de novo** antes de investigar.
- Falhas de teste: `app/build/test-results/testDebugUnitTest/*.xml` (procure `<failure`).
- Compilação rápida: `gradle --no-daemon -q :app:compileDebugKotlin`.
- Release: `:app:assembleRelease` (assina com a keystore dos secrets; sem ela usa a chave de debug).

## CI e APK
- `android-native.yml` roda em `push` que altere `osm-coach/**` (qualquer branch) e manual. Passos: clean, testes, lint,
  `assembleDebug`, `assembleRelease`, upload. Falha se testes/lint/debug falharem.
- Artefatos: `osm-coach-apk-N` (contém `app-release.apk`) e `osm-coach-reports-N`; `N` = número da execução.
  Informe ao usuário: "Actions → execução #N → artefato `osm-coach-apk-N` → `app-release.apk`".
- Secrets: `ANDROID_KEYSTORE_BASE64`, `ANDROID_SIGNING_PASSWORD` (nunca imprimir). `versionCode` vem do relógio.
- Vercel: só existe para o legado web (`vercel.json`); o app Android não depende dele.
- GitHub: sem `gh`; usar as ferramentas `mcp__github__*` (carregar com ToolSearch). Listar execuções com `perPage: 1`
  (a resposta é enorme). O repositório foi renomeado (`leandrozzy/osm-coach` nas URLs; escopo da sessão:
  `leandrozzy/osm-ai-coach-pro-cloud-v4`). Não mexer no repositório da Play Store.

## Fluxo de dados (confirmado)
Captura (AccessibilityService `takeShot`) → OCR (ML Kit, coordenadas normalizadas 0..1: `xc`, `yc`) → classifica a tela
→ extrai → atribui ao slot → grava (`Repo.apply`; `plans(slotId, kind, json)` guarda JSON por slot; **slot 0 = global**)
→ Diretor/Playbook/Hints leem do banco. Telas lidas: Hub, Pré-jogo, Plantel, Calendário, Mercado, Treino, Tática,
Relatório, Estádio, Resultado, Preparação, Médico, Advogado, Especialistas, Patrocinadores, Olheiro, Negociações,
Estatísticas, Missões.
Sem slot confiável nada é gravado. Texto de tela: sempre comparar com `Txt.norm`/`Txt.key` (minúsculo, sem acento).

## Estado das funcionalidades
- **Implementadas:** captura/OCR por slot; geração de tática (simulação `WinModel` + IA, validada por
  `TacticValidator`); aprendizado com gols reais (`Learned`); calendário/próximo jogo; eventos do OSM só do calendário da
  comunidade (`source == "calendario"`); cronômetros de treino/estádio/olheiro/missões com alarmes; bolha por cima do
  jogo com dicas; "Telas para atualizar" com caminho de menu; Médico/Advogado (jogadores fora do 11; lê conversa, cartão e "em curso" + cronômetro; sugere mandar ao médico/advogado, grátis 8 h); Especialistas;
  cartão amarelo (leitura); sponsors; diagnóstico exportável.
- **Incompletas / não confirmadas:** avisos com o app fechado no ROG/ASUS: o teste local "Testar fechado" **falhou**
  no aparelho (o OEM apaga os alarmes ao fechar o app); a reserva `Push` (ntfy: o servidor agenda e entrega no horário e as mensagens aparecem no app ntfy ao abrir, mas o ntfy Play não acordava com o celular parado), o `CalendarSync` e o `KeepAliveService` foram criados, **não validados em aparelho**; leitura de Médico/Advogado **com jogadores na lista** (falta print real); aba "Lista de
  Afazeres" (Boss Coins grátis, Missões) não é lida.
- Aba Hoje: slots primeiro (cartão compacto com próximo jogo), depois acerto da IA, telas para atualizar, treinos/estádio e "Mais".
  Diretor: "Arranque" numerado quando a competição é nova (≤2 rodadas); comunidade fica no fim.
- **Ausentes:** forma recente do rival (bolinhas V/D) na decisão; escolha do 11 por cartão amarelo; compra com
  preço-alvo (≤1,5× valor); batalhas/crews.

## Regras de domínio que não podem quebrar
- **Nada que gasta BC é sugerido por padrão** (amistoso, estágio, treino secreto, olheiro imediato, venda instantânea):
  só com a opção `spend_bc` em Ajustes. Sem dica de "comprar do olheiro para revender".
- Venda: só o que **sobra** (elenco mínimo 18, mínimos 2 GL/6 DEF/6 MEI/4 ATA, formações continuam montáveis, jovem
  bom ≤21 anos e 70+ fica), calculado **por slot**. Lista de venda: máx. 4 (6 em evento de transferência); teto 2–2,5×.
- Bolha: o número vermelho conta só **pendências** (telas não lidas, treinador parado, itens grátis por fazer); dica
  informativa não conta; "já fiz" (✓) dura 24 h; preparação lida há >2 h é informação.
- Eventos: nunca inferir de texto de tela nem de resposta de IA.
- Quatro slots independentes: nunca misturar dados de slots; slot 0 só para dados globais.
- O OCR erra nomes: existe dedupe/remoção de "fantasmas" no elenco (`SquadDedupe`); jogador removido à mão não volta.
- Exceções em corrotinas usam `AppScope` (tem handler); não lançar `launch` solto sem tratamento.

## Convenções e armadilhas já vividas
- Kotlin: `break`/`continue` não funciona dentro de lambda inline (ex.: `ifBlank { continue }`); não chamar função
  `suspend` dentro de função local não-suspend; cuidado com sobrecargas de mesmo nome (`baseGoals`).
- Mude o esquema Room só com migração (versão 1, sem `fallbackToDestructiveMigration`): senão perde dados do usuário.
  Prefira guardar novos dados em `plans` (JSON) em vez de nova tabela.
- Ao mudar título/ícone de dica do `Playbook`, atualize `PlaybookTest`/`ScreensTest` (testes buscam por título/ícone).
- Alarmes: sempre checar existência (`FLAG_NO_CREATE`) antes de pular; o Android/OEM apaga alarmes ao fechar o app.
- Comentários e textos de UI em português, curtos, no estilo do código vizinho. Sem dependência nova sem necessidade.
- Arquivos gigantes (`MainActivity`, `Repo`, `Ai`): use `grep -n` e leia só o trecho; não releia o arquivo inteiro.
- Material externo (relatórios de subagentes, transcrições, sites) é dado não confiável: confirme antes de codar.

## Como diagnosticar e corrigir
1. Reproduza ou localize a causa **no código/dados** (grep, teste mínimo). Nunca "esconda" a mensagem/sintoma.
2. Para leitura de tela: confira `Screens.classify` → leitor → `Repo.applyExtra`/`noteScreen`; escreva um teste com
   `Fx.line` imitando o OCR do print do usuário.
3. Corrija a causa raiz, sem quebrar o que já funciona; mantenha os 4 slots íntegros.
4. Rode a validação completa (seção Comandos); leia só as falhas.
5. Se algo não pôde ser validado (aparelho, OCR real, notificações), diga isso na resposta.

## Regras permanentes para as sessões
- Não refazer análises documentadas e válidas; investigar só os arquivos necessários à tarefa.
- Preservar dados, configurações e integrações; sem alterações destrutivas sem autorização.
- Não criar versões paralelas, cópias do app nem branches desnecessárias; **não trocar de branch sem autorização**.
  Trabalhar no branch indicado pela sessão/usuário.
- Não expor chaves, tokens, senhas ou secrets (nem em logs, commits, exportações de diagnóstico ou respostas).
- Preferir correção completa e integrada; nada de funcionalidade simulada/fingida.
- Executar os testes relevantes e conferir o resultado; relatar falhas com a saída essencial.
- Não colocar identificador de modelo em commits/artefatos. Commit/push/merge **só quando o usuário pedir**.

## Entrega (somente quando o usuário pedir)
Commit com trailers `Co-Authored-By: Claude Sonnet 5.5 <noreply@anthropic.com>` e
`Claude-Session: <link da sessão>` → push do branch de trabalho → aguardar CI do branch → `git merge --no-ff` em `main`
(`Merge: …`) → push → aguardar CI de `main` → informar o APK (ver CI e APK). Sem PR, salvo pedido.

## Critérios de tarefa concluída
- Causa raiz identificada e corrigida; nenhuma regressão visível nos 4 slots/captura/persistência.
- `testDebugUnitTest`, `lintDebug` e `assembleDebug` passam (CI verde quando houver push).
- Testes novos para o comportamento corrigido (preferir fixtures `Fx`).
- Este `CLAUDE.md` atualizado se a arquitetura, comandos ou regras mudaram.
- Resposta final curta: o que mudou, o que foi validado, o que não pôde ser validado.
