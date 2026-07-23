# HANDOFF — registro de troca entre IAs (Claude / Codex)

## 2026-07-23 (321) - Claude - commit da partida Katakuri x Krieg pendente

Retomando a sessao apos o Codex ficar sem limite: o codigo do bloco 320
(Choose 0 real, `cost N or more`, ordem `Add DON -> K.O.`, triggers
`when_don_returned`) ja estava commitado em `3ae477d`, nada pendente ali.
So a partida `Charlotte.Katakuri-P_x_Krieg-RG_2026-07-23T14.12.36` (derrota,
11 turnos, bot=P1/Katakuri) estava jogada e salva em raw/parsed/decks/index
mas sem commit. Commitada em `d87a9a0`. Push feito em seguida. Nenhuma
mudanca de codigo nesta sessao.

Analisando `metrics/live_runs/live_2026-07-23T14.12.39.json`: essa partida
(e a do Jinbe, bloco 319, mesma sessao) **nao valida o bloco 320**. O
`commit_consistency` mostra que o servidor do engine ficou rodando o
commit `924baf1` (12:20) a sessao inteira (`decisions_2026-07-23T12.21.24`),
sem reiniciar depois do commit `3ae477d` (13:57, bloco 320). Ou seja Choose
0 real, `cost N or more`, ordem Add DON->K.O. e sinergia `when_don_returned`
seguem sem nenhuma partida ao vivo testando-os. Proxima sessao PRECISA
reiniciar o `engine_server` depois de puxar `3ae477d` antes de jogar, senao
o teste ao vivo continua invalido.

Alerta adicional dessa sessao (Jinbe+Krieg): `gate_status: fail`, 2
`decision_timeouts`, 13 `bot_confusion` tipo `no_eligible_action`, 0
vitorias em 2 jogos.

Investigados os 13 casos em `decisions_2026-07-23T12.21.24.jsonl`: NAO sao
bug. 12/13 tinham `activeDon: 0` (nada pra pagar); um deles a mao tinha
Mamaragan (OP15-078, custo 0) mas o efeito principal exige `don_minus 2`
que o bot nao tinha — corretamente recusado (regra "so paga custo se
produz efeito"). O 13o (turno 6, Jinbe, `activeDon: 1`) tinha 2 candidatos
de 1 custo mas ambos com `cheap_redundancy_penalty` maior que o valor
intrinseco (board com 5 personagens, copias redundantes) — tambem correto
recusar. Conclusao: os 13 sao "nada de valor pra fazer" legitimo, nao
confusao real. Achado colateral (nao corrigido, so registrado): o
`score_components` do Mamaragan nao fecha a conta (intrinseco 90, score
final -959, ~1049 de penalidade nao logada) — gap de instrumentacao no
`score_components_coverage_pct` (78%), faz o gate `bot_confusion` tratar
passe correto como erro. Nao mexi nisso, e area de scoring compartilhada e
exige aprovacao antes de alterar.

Servidor `engine_server` reiniciado nesta sessao: matei o processo antigo
(PID 16092, de pe desde 12:21, commit `924baf1`) e subi um novo em
`884de9c` (inclui bloco 320 completo). Log:
`BOT/engine_server/logs/session_2026-07-23T15.47.08.log`, porta 8765.
Pronto pra usuario testar ao vivo no OPTCGSim — proxima partida agora sim
valida Choose 0, `cost N or more`, ordem Add DON->K.O. e sinergia
`when_don_returned`.

## 2026-07-23 (320) - Codex - Choose 0, parser composto e sinergia DON

Implementadas as correcoes aprovadas apos a partida Katakuri x Jinbe:

- Plugin agora confirma a selecao pelo botao REAL exibido pelo jogo, preservando
  `myType` e `iChoiceInt`. A lista cobre SelectTargets, Friendly, Enemy,
  EnemyCharacters/Leaders/Stage, Trash e Infinite. Isso corrige o caso
  "Choose 0 enemy Characters", que antes caia no fallback SelectTargets e
  percorria dezenas de candidatos invalidos.
- Parser `set_active` reconhece `cost N or more` como `cost_gte`; OP11-067
  passou de `cost_eq=3` para `cost_gte=3`.
- Familia textual `Add DON. Then, K.O.` preserva a ordem real: OP13-061,
  OP14-064 e ST34-002 agora resolvem add_don antes do K.O. opcional. Assim
  Cracker rampa mesmo sem alvo para K.O.
- Motor valora triggers `when_don_returned` realmente ativos (timing,
  condicoes, limiar e once-per-turn). DON-minus usa custo liquido depois do
  trigger; com ST34-001 em campo, devolver 1 pelo lider OP11-062 reconhece
  que adiciona 2 restados e deixa de recusar a habilidade apenas por curva.

Auditoria do parser antes de atualizar snapshot: GANHOU=0, PERDEU=0, MUDOU=4
(somente as quatro cartas esperadas). Depois da regeneracao: diff=0.
`smoke_fast.py` = SMOKE FAST OK, incluindo 5 asserts novos; relatorio de
eficiencia = 14/14. Plugin compilou com 0 erros/0 avisos e a DLL foi copiada
para o BepInEx. Proxima etapa obrigatoria: partida ao vivo para validar
Choose 0, ramp de Cracker/Katakuri e uso contextual do lider com ST34-001.
O clique em DON anexado do bloco 318 tambem continua aguardando validacao real.

## 2026-07-23 (319) - Codex - partida Katakuri x Jinbe: alvos opcionais e sinergia DON

Partida `Charlotte.Katakuri-P_x_Jinbe-G_2026-07-23T13.26.50`, bot=P1/You,
salva automaticamente em raw/parsed/decks/index. Relatorio
`metrics/live_runs/live_2026-07-23T13.26.53.json`, decision log `12.21.24`,
commit executado `924baf1`.

Comparacao com Katakuri x Ace: execucao permaneceu 100%, state_after subiu
98,75% -> 100%, regret contrafactual permaneceu 0 e ataques abaixo do alvo
caíram 1 -> 0. Ataques do bot: 8 (6 Leader/2 Character), contra 9
(6 Leader/3 Character); dano permaneceu 2. Desenvolveu 8 cartas contra 5.
Nao e comparacao causal porque o oponente mudou.

Demoras do Cracker ST34-002 e Katakuri OP11-067 nao vieram do endpoint:
Cracker 3-5ms, Katakuri 3-6ms. O plugin percorreu dezenas de candidatos
invalidos, chamou `/choose_target` 3x e usou fallback SelectTargets. Falta
tratar explicitamente escolha opcional vazia via botao `Choose 0`.

Dois erros semanticos confirmados no banco: ST34-002 diz add DON e DEPOIS KO
opcional, mas esta parseado KO -> add_don; OP11-067 diz custo 3 OU MAIS, mas
esta parseado `cost_eq=3`. Isso impede ordenar corretamente os ate 2 alvos e
pode bloquear o step posterior de add_don. Requer correcao de familia/parser
aprovada antes de editar.

Sinergia: ST34-001 estava em campo no late game e o motor recusou todas as
ofertas do efeito do Leader OP11-062 no turno 7. Ele nao valora o evento
`when_don_returned`: devolver 1 DON dispararia ST34-001 para adicionar 2
restados (ganho liquido +1). Proximo ajuste estrategico deve somar triggers
de DON-return ao beneficio/custo de `don_minus`, especialmente no late game.
O teste nao teve DON anexado, portanto o fix fisico do bloco 318 continua sem
validacao ao vivo.

## 2026-07-23 (318) - Codex - pressao liquida e clique real no DON anexado

Implementadas as quatro correcoes aprovadas apos a partida Katakuri x Ace:

- `critical_threats()` nao classifica mais qualquer corpo 6000 como critico.
  Usa valor futuro: efeitos recorrentes, blocker, Double Attack e poder acima
  do Leader. `On Play` ja resolvido nao conta; Yamato OP13-054 deixa de ganhar
  prioridade artificial.
- Ataque em Character desconta `don_opportunity_cost()` do DON necessario para
  alcancar o alvo. Pressao na vida e remocao agora competem em valor liquido,
  em vez de o Character receber vantagem sem pagar pelo DON anexado.
- Bonus fixo `+300` de ameaca foi substituido pelo valor futuro real, limitado
  a 120. O mesmo orcamento de DON da linha valida se o ataque pode conectar.
- Ataque abaixo do alvo so e gerado se o [When Attacking] muda materialmente
  recursos/campo. Buff do proprio combate ja incapaz de alcancar o alvo e
  peek/reveal puro nao justificam mais 5000 -> 7000.
- Causa C# do DON anexado fechada: `CollectTargetCandidates` encontrava os DON
  em `lgo_AttachedDon`, mas `ClickTargetCandidate` so procurava zonas normais
  e DonCostArea. Agora procura primeiro nos DON anexados de Leader/Characters,
  permitindo que o jogo execute `ReturnDonFromCard`.

Validacao: `py_compile` limpo; `smoke_fast.py` = SMOKE FAST OK, com tres casos
novos (Yamato nao critica, custo de 4 DON perde para pressao, ataque abaixo sem
ganho bloqueado); `test_bot_efficiency_report.py` = 14/14; `dotnet build` =
0 erros/0 avisos e DLL copiada ao BepInEx. Ainda requer partida real para
confirmar o clique anexado e o novo equilibrio de alvos.

## 2026-07-22 (317) - Codex - partida Katakuri x Ace: melhora real e gap C# do DON anexado

Partida `Charlotte.Katakuri-P_x_Portgas.D.Ace-RB_2026-07-22T23.55.21`,
bot=P1/You/Katakuri, salva automaticamente em raw/parsed/decks/index. Relatorio
`metrics/live_runs/live_2026-07-22T23.55.24.json`, decision log `23.41.13`,
commit executado `26c50fb`.

Comparacao com Katakuri x Smoker (bloco 314): ataques do bot na vida subiram
2/8 -> 6/9 e dano 1 -> 2; portanto nao confirma "quase so Character" no total.
Mas confirma vies local: Yamato 6000, sem valor recorrente depois do On Play,
entrou em `critical_threats()` apenas pelo poder e recebeu bonus fixo +300;
ataques ao Character marcaram 390 contra 15-20 na vida. Rever ameaca pelo valor
futuro/remocao liquida, nao por limiar bruto de 6000.

Sinais de melhora: turno de curva jogou Cracker antes da Pudding, nao gastou
Divine Departure/Mamaragan, regret contrafactual caiu 8,812 -> 0 e execucao
permaneceu 100%. Houve 1 ataque planejado abaixo do alvo: Leader 5000 contra
Ace 7000, sem DON; ainda e erro estrategico. P95 subiu 53,843 -> 120,218 ms,
maximo caiu 1374,797 -> 1045,444 ms; adversarios diferentes, nao causal.

DON anexado: causa isolada. Em cinco `/choose_target` do turno final, o motor
ordenou os 8 `own_don_attached_used` antes do DON ativo. Mesmo assim eles nao
sumiram; o DON ativo caiu 2 -> 1 -> 0. A decisao Python esta correta, mas o
clique C# em DON anexado e no-op/nao seleciona a carta. Proximo fix deve auditar
o caminho de clique/objeto de DON anexado no `BotExecutor`, sem mudar o motor.

## 2026-07-22 (316) - Codex - telemetria causal da decisao e dos recursos

Instrumentacao adicionada sem alterar ranking, busca ou execucao das acoes:

- Cada acao pontuada registra componentes observaveis: valor intrinseco,
  redundancia barata, valor de ramp, valor/custo de DON e gap de poder.
- Cada decisao principal registra ledger antes da acao (DON ativo, restado,
  anexado e total, mao, campo e vida), plano da busca e latencia separada em
  geracao/score, line search e total do motor.
- Ataques registram poder antes/depois do DON planejado, poder do alvo e gap.
  Isso conta ataques abaixo do alvo sem confundir intencao com counter/efeito.
- `/execution` correlaciona estado anterior/posterior e registra deltas de
  recurso. Nova partida fecha como `aborted` a anterior que teve decisoes mas
  nao recebeu outcome, evitando cobertura artificialmente baixa.
- `bot_efficiency_report.py` agrega cobertura dos instrumentos, latencia,
  sinais de recurso e qualidade dos ataques. Log antigo fica com cobertura 0,
  sem fabricar eficiencia.

Validacao: `py_compile` limpo; `test_bot_efficiency_report.py` = 14/14;
`smoke_fast.py` = SMOKE FAST OK (terminal precisou `PYTHONIOENCODING=utf-8`
por causa do caractere ① num teste preexistente). Proxima partida real deve
ser analisada pelo novo bloco `instrumentation`; ainda nao prova melhora.

## 2026-07-22 (315) - Codex - linha publica, valor marginal e orcamento DON

Implementacao estrutural aprovada apos o diagnostico do bloco 314:

- Busca ao vivo com informacao adversaria mascarada agora pode ESCOLHER a
  melhor linha; todas as candidatas usam o mesmo estado publico, sem inventar
  texto/counter das cartas UNKNOWN. Telemetria `line_search` registra depth=4,
  orcamento DON, numero de candidatas e acao escolhida.
- Ramp (`add_don`/`set_don_active`) recebe valor marginal pelo turno de curva
  que antecipa. Corpos custo <=2 recebem desconto crescente por repeticao de
  papel/copia no campo. Reproduzido turno 3: Cracker supera terceira Pudding.
- Eventos fazem preflight dos custos do proprio efeito. Divine Departure nao
  entra com menos de 5 DON ativos; evento que so se repoe por draw precisa de
  controle material; Mamaragan sem alvo e atrasando bomba fica bloqueada.
- Custo de DON de Activate/attach usa oportunidade real da melhor jogada que
  bloquearia. Peek de topo e informacao, nao vantagem de carta, e perde valor
  em fontes repetidas; duas Puddings nao recebem DON automaticamente.
- Ataques agora usam o mesmo orcamento DON da jogada principal. Buff opcional
  com DON-minus recusado pela curva nao infla o poder de declaracao: fecha o
  5000->6000 que depois saia seco por o DON estar reservado.
- Substituicao de remocao compara valor do corpo salvo com custo irreversivel;
  Nola nao devolve DON/atrasa curva para salvar corpo barato.
- Plugin passou a coletar DON anexado como zonas proprias. Ordem do motor:
  anexado em carta que ja agiu -> DON restado -> anexado ainda nao usado ->
  DON ativo. Fecha o gap explicitamente observado no efeito do Katakuri.

Validacao: `smoke_fast.py` = SMOKE FAST OK, incluindo cenarios dirigidos da
partida 23.07; `test_bot_efficiency_report.py` = 13/13; `py_compile` limpo;
`dotnet build BOT/OPTCGBotPlugin/OPTCGBotPlugin.csproj` = 0 erros/0 avisos e
DLL copiada para o BepInEx. Ainda exige partida real antes de declarar melhora.

## 2026-07-22 (314) - Codex - partida 23.07: execucao melhor, plano de turno pior

Partida real `Charlotte.Katakuri-P_x_Smoker-B_2026-07-22T23.07.07_p2`,
bot=P1/You/Katakuri. Auto-coleta salvou raw/parsed/decks e atualizou o indice.
Relatorio `metrics/live_runs/live_2026-07-22T23.07.10.json`, decision log da
sessao `22.42.43`, commit executado `65cdb86`.

Comparacao com Katakuri x Kaido do bloco 312: execucao permaneceu 100%,
cobertura de acoes subiu 93,056% -> 94,783%, p95 caiu 91,666 -> 53,843ms;
porem regret contrafactual piorou 4,778 -> 8,812, maximo subiu para 1374,797ms
e `no_eligible_action` foi 5 -> 6. A sessao nova contem um mulligan/partida
adicional sem outcome, portanto outcome coverage 50% nao e comparacao causal.
Os oponentes tambem diferem; usar o diff como diagnostico, nao prova causal.

Falhas estrategicas confirmadas no turno 3: com 4 DON, Cracker ST34-002 (rampa
1 DON rested + KO custo <=2) marcou 160, mas Pudding marcou 175 e foi escolhida;
depois Nola marcou 25, Divine Departure passou de -999 para 90 apos anexar DON
na Pudding, Pudding ativou por 60 e o ultimo DON foi anexado na segunda Pudding.
O motor executou a ordem corrigida, mas nao avaliou valor liquido nem preservou
o plano Cracker. Ha forte vies repetitivo para searchers/baixo custo.

Outros sinais: ataques 5000 em 6000/7000 apenas consumiram counter e ataques
posteriores ficaram realmente abaixo do alvo; 4 DON foram anexados a Nola para
atacar 6000 em alvo que terminou 8000. Nola protegeu alvos de custo/valor baixo:
efeito foi mecanicamente valido, mas estrategicamente caro. Mamaragan ainda e
pontuada pelo draw sem exigir valor suficiente do rest/curva. No turno 5 havia
DON anexado em personagem, mas selecao do efeito do lider/targets causou longa
espera; auditar se o retorno prioriza DON anexado antes de DON ativo/rested.

Conclusao: o fix 313 fechou ordem/relevancia local, mas a partida nao melhorou
a qualidade global. Proxima correcao deve ser estrutural: plano de turno com
orcamento DON, valor marginal de efeitos repetidos, penalidade de congestionamento
de corpos 0/baixo custo, e avaliacao conjunta ataque+reacao+acao principal.

## 2026-07-22 (313) - Codex - efeito de combate relevante, curva DON-minus e ordem da Pudding

Implementadas as correcoes aprovadas apos a partida do bloco 312:

- Buff `self`/Leader com custo durante combate agora e recusado quando a
  propria carta nao e o defensor. Fecha exatamente Pudding 0 -> Pudding 0:
  Katakuri fora da batalha nao devolve mais DON para se buffar.
- Contexto de combate sem poder valido (0/0) falha fechado para custo
  irreversivel.
- `DecisionEngine.don_minus_delays_hand_curve()` identifica bomba relevante
  acima do DON atual. Um buff que apenas taxa counter, sem virar o poder cru,
  nao paga DON-minus quando isso mantem a bomba presa na mao. Buff que vira o
  combate continua permitido. A decisao de curva permanece no motor unico.
- Activate:Main com `don_requirement` so entra na lista quando o DON ja esta
  anexado. Pudding OP11-070 agora produz `attach_don` primeiro e `activate`
  apenas na decisao seguinte, em vez de ativar/pagar/restar antes do requisito.

Validacao: `py_compile` limpo; `python smoke_fast.py` = SMOKE FAST OK, com
testes novos para defensor alheio, contexto 0/0, custo de curva e sequencia da
Pudding; `python -m unittest test_bot_efficiency_report.py` = 13/13 OK.
Somente Python; reiniciar o engine/JOGAR.bat antes da proxima partida. A
partida real ainda e obrigatoria para declarar o sintoma resolvido.

## 2026-07-22 (312) - Codex - partida 22.30: Katakuri ainda paga efeito sem valor

Nova partida real `Charlotte.Katakuri-P_x_Kaido-P_2026-07-22T22.30.34`,
bot=P1/You/Katakuri, derrota. Log auto-salvo corretamente no banco; recibo e
relatorio `metrics/live_runs/*22.30.37`, decision log da sessao `22.12.59`,
commit executado no jogo `f007836`.

Telemetria melhorou mecanicamente: 72 decisoes, 69 confirmed, 0 failed, 3
pending; execucao e state_after 100%; latencia media 22,8ms/p95 91,7ms/max
882,7ms; contrafactual 100% sobre 9 decisoes elegiveis, regret medio 4,778.
Gate ainda FAIL por 5 `no_eligible_action` e 3 pending. Bot perdeu 0-1.

Diagnostico estrategico confirmado:
- Katakuri pagou `DON!! -1` 6 vezes. Duas foram desperdicio inequívoco:
  Pudding 0 atacando Pudding 0 (lider nem participava; defensor uid=10,
  telemetria recebeu attacker/defender power=0/0 e aceitou reaction) e Sanji
  & Pudding 7000 no lider 5000 (buff 5000->6000 nao virou combate; tomou dano).
- As quatro ofensivas geraram dano ou exigiram counter 2000, mas manter esse
  uso quase automatico impediu crescer o pool: o bot acumulou duas Linlin
  ST34-004 e outras cartas caras sem chegar na curva para joga-las.
- Pudding OP11-070 ainda tem erro de sequenciamento/semantica: no turno 2 o
  bot ativou primeiro (pagou DON -1/restou), o log nao mostrou o peek, e so
  DEPOIS anexou 1 DON; no turno 3 repetiu a ativacao sem efeito visivel.
  A telemetria chamou de confirmed apenas porque `actionUsed` mudou, portanto
  transition_semantics=100% nao detecta que o beneficio real faltou.
- Tamago terminou atacando Leader 4000 vs 5000 sem efeito registrado; foi
  ataque incapaz de pressionar e aparentemente sem beneficio de gatilho.

Proxima correcao recomendada, ainda NAO implementada: (1) reaction de buff
de combate so pode aceitar se o ator for atacante/defensor relevante; contexto
0/0 ou defensor diferente do ator deve recusar; (2) custo DON-minus precisa
comparar ganho marginal com marco de curva/deploy futuro, inclusive nos usos
ofensivos que taxam counter; (3) Pudding deve anexar requisito antes de ativar
e confirmed sem mudanca do efeito esperado deve falhar semanticamente; (4)
ataque trigger-only so passa se o gatilho estiver viavel e for aceito.

## 2026-07-22 (311) - Codex - alvo de ataque, search contextual e contrafactual live

Correcao implementada a partir da partida Kid x Katakuri do bloco 310:

- Ataque contra Character agora exige `poder final >= poder do alvo`. Um
  `[When Attacking]` util nao autoriza mais escolher Character inalcançavel;
  ele pode justificar atacar o Leader ou outro corpo alcançavel. Caso Tamago:
  4000 ataca corpo <=4000; +1 DON ataca <=5000; nunca 6000 -> 9000.
- Search `top_deck` deixou de usar `avaliar_carta` puro. A regua contextual
  combina valor intrinseco, jogabilidade agora/proximo turno, counter na mao,
  aceleracao, win-con do GamePlan e retorno decrescente para bombas caras sem
  counter ja acumuladas.
- Contrafactual ao vivo: quando ha 2+ acoes elegiveis, o bridge simula ambas
  contra o mesmo estado publico mascarado e grava `search_values` com
  `counterfactual_basis=masked_public_state`. Isso e auditoria apenas: nao
  troca a escolha por uma simulacao otimista de UNKNOWN. Offline/modelo
  conhecido continua podendo refinar a jogada.
- `bot_efficiency_report` agora calcula cobertura contrafactual sobre decisoes
  main com 2+ alternativas (nao sobre target/defesa/decisao unica); gate subiu
  de 20% para 95%. O server persiste a base usada no JSONL.

Validacao: `py_compile` limpo; `python smoke_fast.py` = SMOKE FAST OK, com
testes novos para Tamago/limiar, search sem congestionamento e contrafactual
mascarado; `python -m unittest test_bot_efficiency_report.py` = 13/13 OK.
Nao houve mudanca C#: basta reiniciar `JOGAR.bat`/server para testar. Ainda
pendente do bloco 310: diagnosticar o timeout do fluxo de alvo da Pudding e
tunar o custo de oportunidade de DON-minus via partida nova/telemetria.

## 2026-07-22 (310) - Codex - partida 21.44: telemetria obrigatoria e diagnostico de eficiencia

Partida nova Kid (P1/humano) x Katakuri OP11-062 (P2/bot), bot perdeu;
auto-coleta correta em `logs/` (`2026-07-22T21.44.06`) e telemetria em
`metrics/live_runs/live_2026-07-22T21.44.08.json`, decision log da sessao
`21.14.23`. Regra nova do usuario versionada em AGENTS.md: todo log novo
exige cruzar combat log + JSONL/relatorio de telemetria.

**Diagnostico (nenhum tuning aplicado ainda):**
- Execucao mecanica 95%, mas gate geral FAIL: 89 decisoes, 4 main failed,
  9 pending, state_after 93,258% (<95), bot_confusion 10 (4 sem acao, 5
  client timeouts, 1 stuck), counterfactual coverage 0%.
- Search escolhe `top_deck` por `avaliar_carta` puro. Confirmado no jogo:
  Brulee/Pudding acumularam bombas 8/9/10; no T3 eram 7/7 cartas custo>=5,
  no T5 8/9. Faltam valor de curva, counter da mao, aceleracao e plano futuro.
- Ciclo de DON se auto-sabota: o bot comeca T3/T4/T5 com apenas 4 ativos,
  paga repetidamente Katakuri/Pudding/Tamago e nunca chega a jogar as bombas.
  Nem todo DON -1 foi ruim (um buff defensivo virou combate e outro ataque
  arrancou counter 2000), mas Pudding peek e buffs sem ganho marginal nao
  comparam contra o proximo deploy/curva.
- Ataque Tamago 6000 -> Law 9000 tinha objetivo valido (When Attacking tentou
  KO Bonney e forcou 1 Life para prevenir), mas os 2 DON anexados foram
  desperdicados: o gatilho funcionava atacando seco e o ataque seguia sem
  chance de conectar.
- Pudding/targets: `choose_target` repetiu timeouts e latencias de ~782-912s;
  no T5 a mesma activate foi reoferecida 4x com estado inalterado. O problema
  observado e do caminho target/execution, nao apenas do score da Pudding.

**Proxima ordem recomendada:** (1) corrigir loop/latencia da Pudding e
target; (2) custo de oportunidade de DON por plano de deploy; (3) search
multiobjetivo (bomba unica + curva/counter/aceleracao/plano); (4) separar
valor do gatilho de valor de DON anexado no ataque; (5) self-play pareado.

## 2026-07-22 (309) - Codex - informacao oculta honesta + reveals de Life + teto defensivo real

Revisao dos commits 299-308 achou e corrigiu 3 gaps sistemicos antes da
proxima partida ao vivo:

1. **Decklist adversaria presumida pelo lider:** o caminho ao vivo mascarava
   mao/Life, mas `sim_bridge` ainda escolhia um `.deck` local pelo codigo do
   lider e o tratava como lista exata. `_dto_to_gs(hide_hidden=True)` agora
   marca `hidden_information_masked`; estados adversarios assim nao recebem
   `full_deck_census`, nao usam `opponent_model_for_leader` na busca e nao
   usam decklist local na estimativa de counter. Self-play/offline preserva a
   lista exata, porque ali ela faz parte do estado conhecido.
2. **Reveal de Life nao passava pelo TopDeck:** o oficial implementa
   `PeekSelfLife`/`PeekOppLife` com `SetFaceUp(true)` diretamente em
   `Lgo_MyLifeDeck`. `ReportRevealedCards` agora registra Life face-up dos
   dois lados, alem do fluxo existente de `lgo_TopDeck`.
3. **`max_plausible_defense` nao era maximo:** usava 2000 por counter/event,
   apesar de o banco/motor terem counters de 3000/4000 (OP06-051 tem counter
   impresso 4000). O teto conservador agora usa 4000; isso evita concluir
   falsamente que um alvo e insalvavel e recusar buff util.

Validacao: `PYTHONUTF8=1 python smoke_fast.py` = **OK**, incluindo 3 testes
novos; `py_compile` limpo. `dotnet build` gerou a DLL com sucesso, mas o
post-build nao conseguiu copiar para `E:\Games\...\BepInEx\plugins` por
acesso negado/arquivo em uso. Rodar `JOGAR.bat` com o jogo fechado antes da
partida ao vivo. Proxima etapa depois da validacao real: metricas por lado
com `botSeat`, mascara da propria Life e tuning instrumentado de decisoes.

## 2026-07-22 (308) - Claude -> Codex - RETOMADA: estado da branch e pendencias

**ATENCAO CODEX: todo o trabalho de 21-22/07 esta na branch
`claude/execute-remote-control-3qzqgm` (10 commits alem da main, de
3957440 a este). A main esta PARADA em 4ddda19 (21/07). NAO comece da
main sem puxar/mergear a branch -- decisao de merge e do usuario.**

Resumo da leva (blocos 299-307, detalhes em cada bloco):
- Zonas de alvo do bot: DON restado+ativo (restado 1o), DON do oponente,
  mao do oponente as cegas (`BotExecutor.cs`/`sim_bridge.py`).
- Memoria de reveals (engine: revealed_life/revealed_deck + OpponentModel)
  e persistencia ao vivo (MatchMemory + POST /reveal, server+plugin).
- Jogo honesto: mao/vida do OPONENTE mascaradas ao vivo (UNKNOWN-000,
  contagem+uid preservados), exceto reveladas via MatchMemory.
- `JOGAR.bat` (raiz): 1 clique = pull branch + recompila plugin + reinicia
  server + watch-list.
- Partida real analisada (Kid x Katakuri, bot perdeu 6-0) -> fixes:
  winner por assento do bot (botSeat no /outcome; index corrigido) e guard
  de valor pro buff de batalha com custo (Katakuri -1 DON +1000): defesa
  usa counters REAIS da propria mao (habilita/barateia), ataque usa
  decklist REAL do oponente + reveladas + hipergeometrica + teto fisico
  (counter_estimation, motor unico).

**PENDENTE (em ordem):**
1. Partida ao vivo validando a leva TODA (rodar JOGAR.bat -- recompila os
   commits C# 3957440/bae86b6/1d97706; conferir linhas [OPT] e [EngineClient]
   reveal; conferir winner correto no index e MatchMemory acumulando).
2. Metricas por lado alem do winner (don_por_atk etc. em parse_combat_log/
   bot_efficiency_report) ainda assumem bot=[You] -- corrigir usando o
   botSeat (bloco 304).
3. Vida PROPRIA do bot ainda vai com code real no DTO (info oculta no jogo
   real) -- mascarar exige revisar decisoes de trigger (bloco 301).
4. Tuning (validar com self-play/tune_weights antes de ligar): custo de
   oportunidade de DON no early (3 deploys/partida), sequenciamento de
   counters dentro do turno (bloco 304).
5. Parser: 213 suspeitos do audit_parser_coverage, NENHUM em deck salvo;
   lote 1 triado ("filtro de custo perdido": OP04-118, OP03-096, OP12-096,
   OP09-051, OP03-070, OP16-092) aguardando aprovacao do usuario (bloco 268).

Validacao desta sessao: testes unitarios em cada fix + smoke_fast SEMPRE
verde. C# NAO compilado na nuvem (sem dotnet) -- JOGAR.bat compila.

## 2026-07-22 (307) - Claude (sessao remota web) - estimativa de counter usa a DECKLIST REAL do oponente

Fecha o limite declarado no bloco 306 (usuario concordou): em vez da
densidade tipica de formato (12x1000+4x2000), `estimate_opp_counter`
aceita `deck_counter_1000/2000` reais. O guard do buff deriva do MESMO
lookup ja usado pelo OpponentModel/full_deck_census
(`deck_cards_for_leader(opp_gs.leader.code)`), liquidando as copias
VISIVEIS fora de mao/deck (trash/board/stage/reveladas). Sem decklist
(lider desconhecido) cai na densidade tipica como antes.

Efeito pratico validado em teste: 5000vs5000 contra deck SEM counter ->
recusa (a densidade tipica pagava); contra deck 2000-pesado -> paga
(defesa provavel 7000, +1000 cruza). counters_seen_used zerado quando a
decklist real e usada (as copias ja saem pelo desconto de zona visivel --
evita descontar 2x). smoke_fast verde.

Nota: `max_plausible_defense` (teto fisico mao+DON) segue generico
(2000/carta) -- superestima o teto contra deck sem counter, mas o teto so
e usado pra RECUSAR (alvo insalvavel), entao o erro e conservador.

## 2026-07-22 (306) - Claude (sessao remota web) - guard de buff no ATAQUE vira estatistico (counter_estimation + reveladas)

2o adendo do usuario sobre o guard (bloco 305): no ataque, em vez de
"contagem da mao + chunk 2000" cru, usar o que da pra saber/estimar da mao
oculta. Implementado com o MOTOR UNICO ja existente (counter_estimation.py
+ MatchMemory), nada de regua nova:

1. Cartas REVELADAS da mao dele (known_hand_cards, re-injetadas ao vivo
   pela MatchMemory) entram com valor EXATO;
2. Slots ocultos: estimate_opp_counter (hipergeometrica: tamanho da mao +
   counters ja gastos + trash visto) -> defesa PROVAVEL;
3. max_plausible_defense (mao + DON ativo pra eventos de counter -- ex do
   usuario: 3 cartas e 1 DON = 1 evento + 2 impressos) -> teto real: se
   nem com tudo ele salva o alvo, +N e redundante, recusa.

Ordem de decisao no ataque: perdendo -> paga so se +N vira o cru; mao
vazia OU alvo insalvavel mesmo com a mao toda -> recusa; +N cruza a
defesa PROVAVEL -> paga; senao paga se aumenta os chunks de counter
necessarios (taxa). Defesa continua a do bloco 305 (counters reais da
propria mao). 6 casos novos de teste (incl. exemplo do usuario 3cartas+
1DON e carta revelada) + smoke_fast verdes.

## 2026-07-22 (305) - Claude (sessao remota web) - adendo do usuario no guard de buff: conta considera as CARTAS NA MAO

Refina o FIX 1 do bloco 304 (pedido explicito do usuario). O guard cru
("so paga se o +N vira o poder do combate") errava nos dois lados:

- **DEFESA**: o buff pode HABILITAR ou BARATEAR o counter da propria mao.
  Caso real que o guard anterior recusava: 7000 vs lider 5000 com counter
  2000 na mao -- counter sozinho = 7000 EMPATA (atacante leva); com o
  buff, 6000+2000=8000 sobrevive. Regra nova: paga se o menor numero de
  counters da MAO REAL pra sobreviver diminui com o buff (0 = buff sozinho
  salva; None = morto ate com a mao toda -> recusa).
- **ATAQUE**: buff "taxa" a mao do oponente. Perdendo -> paga so se vira
  (igual antes). Ganhando -> paga se o +N aumenta os CHUNKS de counter
  (granularidade 2000) que o dono do defensor precisa gastar E ele tem
  cartas na mao (mao mascarada, mas a CONTAGEM e real). Ex: 6000 vs lider
  5000 -> +1000 dobra o counter necessario (1->2 chunks) = paga; 6000 vs
  corpo 2000 -> 3->3 chunks = recusa.

9 casos de teste unitario + smoke_fast verdes. So engine (sim_bridge),
nada de C# -- mas a partida de validacao precisa do JOGAR.bat de novo
(pega os fixes 304 tambem, que TEM C#).

## 2026-07-22 (304) - Claude (sessao remota web) - analise da partida Kid x Katakuri + 2 fixes (buff inutil / winner por assento)

Partida de teste da leva 299-303 analisada (`Eustass.Captain.Kid-Y_x_
Charlotte.Katakuri-P_2026-07-22T15.25.14`, bot=Katakuri=[Opponent],
usuario=Kid=[You], derrota do bot 6-0, Kid tomou ZERO dano). Confirmacoes
boas: Mamaragan (DON!! -N) COMPLETOU, lider ativou, auto-coleta OK.
Problemas confirmados no log e 2 corrigidos:

**FIX 1 (engine) — bot pagava DON por buff de batalha que nao vira o
combate.** 2 das 6 ativacoes do lider foram na defesa contra Law 9000:
5000->6000, matematicamente inutil, 1 DON fora + morreu. Causa:
`resolve_reaction` delega nao-redirects pra `resolve_optional_effect`,
que nao recebia contexto de combate — a viabilidade ampla passa (peek
"produz efeito") e pagava sempre. Fix generico em `sim_bridge.py`:
`resolve_optional_effect` ganha attacker_power/defender_power/
actor_defending (derivado do defender_uid em resolve_reaction; a carta
pode ter when_attacking E on_opp_attack identicos — o TRIG nao serve de
discriminador) e um guard: efeito que so tem buff-de-batalha+peek so paga
se o buff VIRA o combate (regua do motor unico buff_wins_combat; janela
indeterminada = conservador, recusa so se nao vira em nenhuma leitura).
Testes unitarios 4 quadrantes + smoke_fast verdes.

**FIX 2 (plugin+server+collect) — winner invertido quando o bot nao e o
assento [You].** O index registrou winner=p2 (Katakuri) numa partida que o
bot (Katakuri) PERDEU 6-0. `_apply_winner` assumia bot=p1=[You] sempre;
nesta partida o bot controlava o assento 2 ([Opponent] — prova: linha
`[Opponent] Downloaded the Combat Log!` e o proprio bot baixando o log).
Fix: `ReportOutcome` (C#) envia botSeat=p1/p2 (BotPlayerIndex), /outcome
repassa, `_apply_winner(bot_seat=...)` mapeia certo. Entrada do index
corrigida manualmente pra p1. ATENCAO pendente: outras metricas por lado
(don_por_atk etc. em parse/report) tambem assumem bot=[You] — nao
corrigidas nesta sessao, conferir antes de confiar nelas em partidas de
assento trocado.

**NAO corrigido (tuning, validar com self-play antes):** custo de
oportunidade de DON no early (3 deploys na partida inteira; Mamaragan -2 +
lider -1 nos turnos 3-5 comeram os deploys); sequenciamento de counters
dentro do turno (gastou Tamago no ataque do Killer e deixou o Kid 6000 vs
5000 passar limpo em seguida).

**C# NAO compilado aqui** — `JOGAR.bat` no desktop recompila tudo.

## 2026-07-22 (303) - Claude (sessao remota web) - JOGAR.bat: preparo de 1 clique pro teste ao vivo

`JOGAR.bat` (raiz do repo): duplo-clique com o jogo FECHADO -> git pull da
branch de teste (claude/execute-remote-control-3qzqgm) -> recompila plugin
(setup_bepinex.ps1) -> mata server antigo (so a janela "OPTCG Engine
Server" aberta por ele mesmo) -> sobe server novo -> imprime a watch-list
dos blocos 299-302. Depois e so abrir o OPTCGSim e jogar. Pre-flight na
nuvem verde (smoke_fast OK, server.py importa limpo); a compilacao C# so
acontece no desktop via o proprio script.

## 2026-07-22 (302) - Claude (sessao remota web) - plugin C# chama POST /reveal (fecha pendencia 1 do bloco 301)

Fecha o ciclo da MatchMemory: sem isso a mascara do bloco 301 funcionava
mas a memoria nunca acumulava (bot ficava so no "nao sei nada").

- `EngineClient.ReportReveal(zone, uids)` -- POST /reveal best-effort
  (mesmo padrao do ReportClientTimeout; falha de rede nao trava o clique).
- `BotExecutor.ReportRevealedCards(gls, botPs, oppPs)` -- le o lgo_TopDeck
  (onde o jogo poe a carta mostrada) e classifica a zona pelo LUGAR onde o
  uid vive agora: mao do oponente (Arlong) / vida do oponente / propria
  vida (Katakuri, OP15-119); quem nao e nada do bot = peek de deck inimigo
  (Pudding). Propria mao e proprio deck NAO sao reportados (bot ja ve a
  mao; own_deck nao e rastreado -- gs.deck ao vivo e placeholder).
- `BotDriver`: no estado ConfirmRevealedCard/ConfirmRevealedCardOnOpponentsTurn,
  chama ReportRevealedCards ANTES do clique de confirmacao (o clique
  esvazia a zona de reveal).

**NAO COMPILADO** (sem dotnet na nuvem) -- `setup_bepinex` no desktop
compila junto com os commits 3957440/d0850b3. Validar ao vivo: linha
`[EngineClient] reveal` no LogOutput + evento "reveal" no decision log +
memoria acumulando no /collection_status... (snapshot no retorno do /reveal).
INCERTEZA declarada: a classificacao por membership assume que a carta
revelada ainda consta na lista da zona de origem enquanto exibida no
lgo_TopDeck -- se o jogo a MOVER (em vez de copiar referencia), tudo cai no
fallback opp_deck; conferir na 1a partida real e ajustar se preciso.

## 2026-07-22 (301) - Claude (sessao remota web) - mao/vida do oponente OCULTAS ao vivo + persistencia de reveals (MatchMemory)

Continuacao dos blocos 299/300. Decisao do usuario (22/07): **o bot joga
como humano vs humano** -- nao pode saber as cartas da mao do oponente,
so as reveladas durante o jogo.

**Achado que motivou:** ao vivo o bot jogava com "raio-X". O plugin manda a
mao E a vida REAIS do oponente no DTO (GameStateBuilder monta BuildPlayer
pros 2 lados com code real; o cliente tem o estado inteiro em memoria) e o
engine USAVA (opp_counter_available soma counters reais de opp.hand; eval_v2
via counter_in_hand). O proprio codigo ja admitia num comentario ("se no
futuro a mao for oculta de verdade... voltar a estimativa").

**Fix (engine_server, nada de C# ainda):**
- `BOT/engine_server/match_memory.py` (NOVO): MatchMemory -- uids
  (`deckUniqueId`, estavel a partida toda) revelados por zona (opp_hand/
  opp_life/own_life/opp_deck). Reset no /mulligan (partida nova).
- `server.py::_dto_to_gs(hide_hidden=True)` -- usado pro OPONENTE nos 3
  endpoints (/defense, /choose_target, /decide): mao e vida viram
  placeholders UNKNOWN-000 (contagem + deckUniqueId preservados -- o uid e
  a "costas da carta", necessario pra clicar como alvo), EXCETO uids na
  MatchMemory, que entram com identidade real E marcados em
  revealed_to_opponent/revealed_life (alimenta OpponentModel/known_*_cards
  = a persistencia ao vivo da MEMORIA_REVEALS.md, pendencia 1).
- Endpoint novo `POST /reveal` {zone, uids}: plugin reporta o que o jogo
  mostrou ao bot; grava na MatchMemory + telemetria (write_event "reveal").

**Efeito colateral esperado (intencional):** counters/blockers da mao do
oponente deixam de ser visiveis -- caminhos que liam a mao real agora veem
UNKNOWN (counter 0). O jogo fica honesto; a estimativa probabilistica
(OpponentModel/counter_estimation por hand_size) e o caminho certo daqui
pra frente. Pode mudar winrate ao vivo -- MEDIR nas proximas partidas.

**PENDENTE (desktop):**
1. Plugin C#: chamar POST /reveal quando o jogo mostra carta ao bot
   (ConfirmRevealedCard, reveal de mao do Arlong, peek de vida/deck). Sem
   isso a MatchMemory fica vazia (mascara funciona, memoria nao acumula).
2. Vida PROPRIA do bot ainda vai com code real no DTO (tambem e info
   oculta no jogo real) -- mascarar exige revisar decisoes de trigger que
   leem gs.life; deixado explicitamente pra depois.
3. Recompilar plugin (`setup_bepinex`) p/ commits 3957440 (zonas DON/mao) e
   testar ao vivo tudo junto.

**Validado aqui:** testes unitarios do _dto_to_gs (mascara com contagem/uid
preservados, re-injecao so do revelado, reset por partida, lado do bot
inalterado) + smoke_fast verde.

## 2026-07-21 (300) - Claude (sessao remota web) - memoria de cartas reveladas (vida/deck/search)

Continuacao do bloco 299 (mesma sessao). Pedido do usuario: quando o bot
revela carta (vida, deck, mao do oponente, e cartas vistas em SEARCH),
registrar na memoria pra o turno e os proximos, e usar isso em decisoes.

**Ja existia (nao reinventado):** `GameState.revealed_to_opponent` +
`known_hand_cards()` + `OpponentModel` (Monte Carlo). `reveal_opp_hand`
(Arlong) ja alimentava a mao conhecida do oponente.

**Estendido (mesmo padrao id(card) + limpeza lazy) pra vida e deck:**
- `GameState.revealed_life` / `known_life_cards()` -- peek/reveal de Life
  (OP15-119 `life_top_revealed_cost`).
- `GameState.revealed_deck` / `known_deck_cards()` -- topo do deck visto por
  SEARCH (`add_to_hand`/`trash_from_looked_deck`, "look at top N": as N cartas
  ficam conhecidas; a que sai some na limpeza lazy) e por peek
  (`peek_opp_deck_top` Pudding, `reveal_opp_deck_top_choose_cost`).
- `__deepcopy__` copia os 2 sets novos (isolados por clone).
- Consumo: `OpponentModel` exclui a vida conhecida do pool e a inclui como
  CERTEZA na amostra (antes toda a vida era desconhecida).

**Doc completo:** `scriptis_da_ia/optcg_engine/MEMORIA_REVEALS.md` (design,
pontos de captura, invalidacao lazy, e o PENDENTE).

**PENDENTE (precisa desktop/ao vivo):** (1) persistencia entre decisoes AO
VIVO -- em self-play a arvore de estados clonados ja persiste, mas ao vivo
cada /decide reconstroi o GameState do DTO; falta camada no engine_server por
match_id (chave `deckUniqueId`, nao `id()`). (2) consumo mais amplo (topo do
proprio deck no sequenciamento, topo da vida em triggers) -- afeta winrate,
validar com self-play/tune_weights antes de ligar.

**Validado aqui:** testes unitarios (accessors+limpeza lazy, deepcopy isola,
OpponentModel usa vida conhecida, captura peek end-to-end) + `smoke_fast.py`
verde. Nada disso mexe no bot C#; e tudo engine (cerebro).

## 2026-07-21 (299) - Claude (sessao remota web) - zonas de alvo faltantes do bot: DON restado/oponente + mao do oponente

Sessao remota (usuario pelo iPhone). Revisao dirigida das zonas que o bot
consegue SELECIONAR como alvo, a pedido do usuario. Achados confirmados no
validador oficial (`decompiled_python/validators.py::_valid_target_location`)
e corrigidos em `BotExecutor.cs` (C#) + `sim_bridge.py`. NAO da pra
compilar/testar ao vivo aqui (sem dotnet/jogo) -- **precisa recompilar via
`setup_bepinex` no desktop e testar ao vivo.**

**Gaps corrigidos:**
1. **DON!! -N (don_minus) so coletava DON ATIVO.** O bloco 298 (`c18b068`)
   matou o ciclo infinito, mas assumiu "DON restado nunca e clique valido" --
   FALSO: `don_minus` RETORNA ao deck (nao resta), e `_valid_target_location`
   aceita `don_area_card` SEM checar `b_tapped`. Agora coleta restado + ativo
   em zonas separadas (`own_don_rested`/`own_don`) e o sim_bridge ordena
   RESTADO antes de ATIVO (preserva o DON usavel neste turno -- pedido do
   usuario). Tambem conserta o risco de nao achar candidato quando so sobra
   DON restado/anexado (When Attacking tardio). DON anexado ainda de fora
   (nao da pra confirmar aqui quais flags o don_minus seta -- ver dnspy).
2. **DON do oponente nunca era candidato.** Adicionada zona `opp_don`
   (`oppPs.Lgo_MyDonCostArea`) -- efeitos do Krieg que restam/retornam DON
   adversario agora tem alvo.
3. **Mao do oponente nunca era candidata.** Adicionada zona `opp_hand`
   (`oppPs.Lgo_MyHand`) para "choose 1 card from your opponent's hand"
   (Arlong OP01-063 `reveal_opp_hand`, Kanjuro OP01-038
   `opp_choose_trash_our_hand`). Emitida SEM code (`hideCode`) -- o bot
   escolhe as cegas, sem trapacear avaliando cartas ocultas.

**NAO era gap (verificado):** mao propria (`own_hand` ja coletado, descarte
pega a pior carta); "olhar topo da vida/deck" (Katakuri/Pudding) resolve pelo
caminho de reveal/botao `ConfirmRevealedCard`/`FinalizeTopDeck`, ja remendado
nos blocos 20-21/07, NAO por clique de alvo -- por isso vida NAO virou zona
de CollectTargetCandidates.

**Validado aqui:** ordenacao DON (restado>ativo>opp_don) + opp_hand incluido
sem code, via teste unitario; `smoke_fast.py` verde.

**EM ANDAMENTO (mesma sessao):** memoria de cartas reveladas (vida/deck/mao
do oponente + reveladas por SEARCH) -- ver bloco/commit seguinte.

## 2026-07-21 (298) - Claude - causa raiz REAL do "líder sem efeito" achada: custo DON!! -N nunca tinha zona de candidato (hipótese do usuário confirmada no código decompilado)

Continuação direta do bloco 297: usuário jogou mais uma partida (já com
os fixes 293-297 + plugin recompilado) e reportou os MESMOS sintomas —
líder sem efeito, Pudding (custo 7, PRB02-010) sem efeito, Mamaragan sem
efeito — e propôs uma hipótese própria: **"o bot tá com dificuldade de
utilizar qualquer efeito que necessita de retornar DON, os famosos
DON!! -N"**. Essa hipótese estava CERTA e é a causa raiz real por trás
de TODOS os travamentos de "líder sem efeito" investigados desde a
sessão anterior (Pudding, Katakuri, Mamaragan) — o fix do bloco 296
(buscar candidatos de novo) era um retrofit sobre um sintoma errado.

**Causa raiz confirmada no código decompilado** do jogo
(`GameplayLogicScript.cs`, método `ValidV3TargetLocation`): pagar um
custo `DON!! -N` (`don_minus` no nosso parser) exige clicar N cartas de
DON na própria `DonCostArea` — um branch de validação de alvo DISTINTO
de personagem/mão/trash/deck/vida/líder/stage
(`vTarget.DonAreaCard && CardObjectInDonArea(go_Clicked)`).
`CollectTargetCandidates` (`BotExecutor.cs`) **nunca incluía essa
zona** — só coletava as 10 zonas de sempre (mão/board/trash/líder/stage
de cada lado + topo do deck). Qualquer carta com custo `DON!! -N`
(Katakuri `when_attacking`/`on_opp_attack`, Mamaragan `[Main]`, Pudding
PRB02-010 `on_play`, e qualquer outra carta com esse padrão) ficava
ciclando pra sempre por candidatos que o jogo SEMPRE recusa (nenhum é
DON), o custo nunca era pago, o efeito nunca resolvia — exatamente o
padrão observado em TODAS essas cartas. O log da última partida mostrou
até 38 chamadas repetidas de `/choose_target` pro mesmo `actor=OP11-070`
retornando a MESMA lista inútil — o refresh do bloco 296 não ajudava
porque o problema nunca foi "lista desatualizada", foi "a zona certa
nunca existiu".

**Fix (genérico, cobre QUALQUER carta com custo DON!! -N, não só as 3
que revelaram o bug)**:
1. `BotExecutor.cs::CollectTargetCandidates` — nova zona `"own_don"`:
   coleta as cartas de DON ATIVAS (não restadas) da
   `botPs.Lgo_MyDonCostArea`. Só DON ativo é clique válido pra pagar um
   custo que exige restar.
2. `BotExecutor.cs::ClickTargetCandidate` — passa a procurar também em
   `botPs.Lgo_MyDonCostArea` ao localizar o alvo pelo id.
3. `sim_bridge.py::order_target_candidates` — zona `'own_don'` ganha
   prioridade MÁXIMA e INCONDICIONAL (antes até de
   `actor_opp_only`/`actor_battlefield_only`, que só fazem sentido pro
   ALVO do efeito, não pro pagamento do custo — perguntas ortogonais).
   Se o step atual não pedir DON, o jogo recusa o clique (mesmo padrão
   de segurança já usado em toda zona) e o próximo candidato é tentado.

Compilado com sucesso (`dotnet build`, 0 erros, 1 warning novo de
nulidade — inofensivo, mesmo padrão já presente em outros arquivos).
Teste novo em [smoke_fast.py](scriptis_da_ia/smoke_fast.py):
`test_own_don_e_candidato_prioritario_pra_custo_don_minus`.
`smoke_fast.py`/`smoke_test.py` 100% verdes.

**IMPORTANTE — precisa rebuild/redeploy pra valer**: mudança em C#, roda
`BOT/setup_bepinex.bat` antes do próximo teste. **Ainda não validado em
partida real** — é a hipótese mais bem fundamentada até agora (código
decompilado do próprio jogo confirma o mecanismo exato), mas só a
próxima partida com Katakuri/Mamaragan/Pudding PRB02-010 confirma que
resolve de verdade.

## 2026-07-21 (297) - Claude - gap sistêmico achado: debuff_power no oponente nunca contava como removal (97 cartas), não era só a Linlin

Usuário questionou o fix da Linlin (bloco 296): "você resolveu só pra
Charlotte Linlin? porque o bot quase nunca joga carta boa e cara" — sinal
de que podia haver um problema mais amplo por trás. Investigando
`avaliar_carta`/`_score_play_action`, achei que o fix anterior (alvo
invertido) era realmente isolado à Linlin, mas revelou um gap MUITO
maior por trás: `is_removal`/`power_buff`
(`gerar_card_analysis_db.py::derive_analysis`) só reconheciam as ações
`{'ko', 'bounce', 'rest_opp_character'}` como "isso é remoção" —
`debuff_power`/`set_base_power` MIRANDO O OPONENTE (reduzir/zerar o
poder de um Character do oponente, funcionalmente equivalente a
remoção pra fins de combate) nunca contavam. **97 cartas** no banco têm
`debuff_power`, **nenhuma delas** ganhava `is_removal`/`power_buff` —
toda essa categoria de cartas de controle (geralmente as mais caras/
fortes do banco, ex: Divine Departure -8000, Linlin) ficava invisível
pros bônus de `avaliar_carta` (+35 de `has_ko`) e pro `habilita_ataque`
de `_score_play_action` (+60, prioriza sair antes dos ataques) — essa é
provavelmente a explicação REAL e ampla do "bot quase nunca joga carta
boa e cara", não um caso isolado.

**Fix**: `is_removal` em `derive_analysis` agora também considera
`debuff_power`/`set_base_power` com `target` em
`{opp_character, opp_leader, opp_leader_or_character, all_opp_characters}`.
Validado: 118 cartas ganharam `is_removal=True` (nenhuma outra flag foi
tocada — diff limpo contra o `card_analysis_db.json` anterior). Score de
jogar Linlin no mesmo estado da partida real: 90 (sem nenhum fix) → 150
(só o alvo corrigido, bloco 296) → **245** (alvo + is_removal
reconhecido). Teste novo em
[smoke_fast.py](scriptis_da_ia/smoke_fast.py):
`test_debuff_power_no_oponente_conta_como_removal`. `smoke_fast.py`/
`smoke_test.py` 100% verdes.

**Ainda não validado em partida real** — é um fix de dado/flag amplo,
não código de execução; o efeito esperado é o bot passar a priorizar
bombas de controle/debuff sobre corpos baratos COM MAIS frequência, mas
só a próxima partida confirma o efeito prático.

## 2026-07-21 (296) - Claude - fix em C#: candidatos de alvo pendente sao buscados de novo se esgotarem sem sucesso (Pudding/Katakuri/Mamaragan)

Continuação direta do bloco 295: usuário pediu pra investigar a fundo o
"líder ainda sem efeito" (mesmo mecanismo do travamento da Pudding e
agora, com o fix do parser, também da Mamaragan).

**Hipótese e fix**: `HandlePendingAction` (`BotDriver.cs`) só chama
`CollectTargetCandidates`/`EngineClient.ChooseTarget` UMA VEZ, no exato
momento em que `iActionStep` muda. Se o jogo ainda não tiver populado
`lgo_TopDeck` (a carta revelada do topo do deck do oponente, via
`StartV3OpponentTopDeck` no `GameplayLogicScript.cs` decompilado) nesse
instante exato — por exemplo se a animação/revelação roda 1+ frames
depois de `iActionStep` já ter avançado — o snapshot de candidatos fica
sem o alvo real PRA SEMPRE: `iActionStep` não muda de novo só porque a
carta apareceu depois, então o código nunca refaz a lista. O bot cicla
por todos os candidatos ERRADOS (mão/campo próprio) até esgotar, sem
nunca tentar buscar de novo. Isso bate exatamente com o padrão visto em
`peek_opp_deck_top` (Pudding e agora Katakuri, cujo custo já é aceito
mas o efeito nunca resolve) e provavelmente também no `rest_opp_character`
da Mamaragan pós-fix de ordem (bloco 295).

**Fix**: extraída a lógica de busca de candidatos pra um método novo
`FetchPendingCandidates`; quando `_pendingOrder` esgota sem sucesso, o
código agora busca a lista DE NOVO uma vez (`_pendingRefreshTried`) antes
de cair no fallback de "confirma seleção parcial"/"cancela". Se a carta
revelada só apareceu depois do snapshot inicial, essa 2ª busca já
deveria pegá-la. Compilado com sucesso (`dotnet build`, 0 erros, só
warnings pré-existentes não relacionados).

**IMPORTANTE — precisa rebuild/redeploy pra valer**: diferente dos fixes
Python (só reiniciar `engine_server`), esta é mudança em C# — o usuário
precisa rodar `BOT/setup_bepinex.bat` (ou equivalente) pra recompilar e
reinstalar o plugin no jogo antes do próximo teste ao vivo. **Ainda não
testado em partida real** — é uma hipótese bem fundamentada (código
decompilado + padrão de log consistente em 3 cartas diferentes), mas não
confirmada.

**DON em personagem fraco em vez de carta boa — causa raiz achada e
corrigida (não era sobre DON)**: `_score_play_action` pontuava "jogar
Charlotte Linlin" (ST34-004, custo 10, 12000 de poder) em só **90.0**,
MENOR que uma carta de custo 3/3000 de poder (ST18-001, 160.0) no MESMO
estado da partida real. Causa: texto real da Linlin é "...up to 1 of
your **opponent's** Characters' base power becomes 0..." — um
removal/debuff forte no OPONENTE — mas `parse_set_base_power`
(`gerar_effects_db.py`) classificava o alvo como `own_character` (o
PRÓPRIO personagem do bot!), porque o regex `up to \d+ of your` casava
como substring de "up to 1 of your opponent's characters" sem checar de
quem é o personagem. O motor achava que a carta ZERAVA o próprio lado —
nunca pontuava bem o suficiente pra competir com jogadas mais baratas.
Fix: novo branch em `parse_set_base_power`, ANTES do branch genérico,
detecta "of your opponent's character" no sujeito e mapeia pra
`target='opp_character'` — já suportado pelo EXECUTOR (mesmo target
usado por Ain OP07-002), só faltava o parser reconhecer. Varredura
global confirmou Linlin como ÚNICA carta com essa forma exata hoje
(`isolated_after_global_scan`). Score de jogar Linlin subiu de 90→150
no mesmo estado testado. Registro em
`parser_audits/2026-07-21_set_base_power_opp_character_mal_classificado_como_own.json`.
`diff_parser.py`: GANHOU=0, PERDEU=0, MUDOU=1. `smoke_fast.py`/
`smoke_test.py` verdes.

## 2026-07-21 (295) - Claude - parser: ordem draw/efeito-no-oponente invertida (5 cartas, Mamaragan inclusa) + registro de auditoria global

Continuação direta do bloco 294 (mesma sessão): usuário aprovou implementar
o fix da Mamaragan (ordem de step) + pediu pra investigar a fundo o
líder ainda sem efeito e o gasto de DON em personagem fraco.

**Fix do parser implementado e validado**: texto oficial da Mamaragan é
"Draw 1 card. Then, rest up to 1 of your opponent's Characters..." — draw
PRIMEIRO. `card_effects_db.json` tinha a ordem invertida
(`rest_opp_character` antes de `draw`) porque `gerar_effects_db.py::
parse_block` despacha os parsers de ko/bounce/rest_opp_character ANTES do
parser de draw (ordem fixa dos `if`s no código, não a ordem do texto).
Varredura global (regex em `cards_rows.csv` inteiro, gramática "Draw N
card(s). Then, [K.O./rest/bounce] up to M of your opponent's...") achou
**11 cartas** com essa forma; **5** tinham a ordem trocada (OP03-097,
OP05-059, OP10-061, OP13-102 [2 blocos], OP15-078 Mamaragan), as outras 6
("Then, give...") já saíam certas. Fix genérico em `parse_block`: detecta
o padrão via `re.search` (não ancorado — prefixos de custo/condição como
"DON!! 2:" ou "If your Leader is X," costumam vir antes de "Draw") e
adiciona o step `draw` cedo, com flag pra não duplicar no dispatch
genérico mais abaixo. `diff_parser.py`: GANHOU=0, PERDEU=0, MUDOU=5
(exatamente as 5 esperadas). Registro completo em
`parser_audits/2026-07-21_draw_then_efeito_oponente_ordem_invertida.json`.
`gerar_dbs.py` rodado, `smoke_fast.py`/`smoke_test.py` 100% verdes.

**Ressalva importante (não superestimar o fix)**: isso corrige a ORDEM
no banco, batendo com o texto oficial — mas NÃO resolve sozinho o
travamento ao vivo da Mamaragan. O step `rest_opp_character` (agora em
2º lugar) ainda pode travar no MESMO ciclo de cliques inválidos já visto
na Pudding e no Katakuri (ver blocos 293/294) — esse é um problema mais
profundo do caminho ao vivo (C#/BotDriver.cs), fora do escopo de uma
correção de parser. Pelo menos o `draw` (sempre executável, sem alvo)
deve passar a acontecer agora — melhoria parcial, não solução completa.

## 2026-07-21 (294) - Claude - 4a partida ao vivo pos-fixes: bonus de "ameaca critica" tinha o MESMO bug de score_attack_target (fix aplicado); Katakuri paga o custo agora mas peek_opp_deck_top ainda trava; Mamaragan tem ordem de step invertida vs texto real (achado, nao corrigido, precisa aprovacao)

Usuário jogou mais uma partida (Katakuri via bot x Doflamingo via humano)
depois de todos os fixes 289-293 e reportou os MESMOS 4 sintomas: Mamaragan
jogada errado, Baron Tamago & Pekoms atacando 6000 contra 9000 (era 7000
base), DON em personagem fraco em vez de carta boa, líder ainda sem
efeito. Pedido: analisar de novo.

**Achado real #1 (causa raiz confirmada, FIX aplicado)**: mesmo com o fix
do bloco 289 (`score_attack_target` não empilha mais bônus de "vale
matar" sem chance de conectar), Baron Tamago & Pekoms (ST34-005) atacou
Vergo (9000 de poder, só 6000 alcançável com 2 DON — impossível) e
pontuou **450** (150 do gatilho `when_attacking` [KO opp_character
power<=2000] + **300** de "alvo é ameaça crítica"). Causa: esse bônus de
+300 vive em `_generate_and_score_actions` (não em `score_attack_target`)
e era somado incondicionalmente quando `priority == 'REMOVE_THREAT'` e o
alvo do ATAQUE está em `critical_threats()` — sem checar se o ataque em
si tem chance de conectar. O gatilho de KO da carta mirava um personagem
DIFERENTE (OP10-065, 1000 de poder, o alvo real e válido), mas o bônus
não distinguia "alvo do ataque" de "alvo do gatilho". Fix: `+300` só
aplica se `atk_power >= tgt.power` ou `atk_power + don_disp*1000 >=
tgt.power` (mesmo cálculo de `pode_matar`). Teste novo em
[smoke_fast.py](scriptis_da_ia/smoke_fast.py):
`test_bonus_de_ameaca_critica_exige_chance_real_de_conectar` — score de
Vergo cai de 450→150, ficando abaixo de atacar OP10-065 (160, o alvo que
o gatilho realmente mata). `smoke_fast.py`/`smoke_test.py` verdes.

**Achado real #2 (progresso confirmado, AINDA quebrado)**: o fix do
bloco 291 (roteamento `resolve_reaction`→`resolve_optional_effect` pra
`when_attacking`/`on_opp_attack`) **funcionou** — log mostra
`[Bot] downside offer (reacao): USAR efeito` pro Katakuri pela primeira
vez (antes era sempre "Cancel"). MAS depois de aceitar o custo, o
`peek_opp_deck_top` (parte do efeito, "look at 1 card from top of
opponent's deck") entra no MESMO ciclo de cliques inválidos já visto na
Charlotte Pudding — tenta ST34-001, OP07-077, ST18-001, OP11-067,
OP15-078 etc (cartas da PRÓPRIA mão do bot), nunca resolve. O fix do
bloco 293 (`_implied_target` não classifica mais `peek_opp_deck_top`
como `opp_character`) evitou uma REGRESSÃO mas não resolveu a causa raiz
— a zona `top_deck` continua sem conter (ou sem ser tentada a tempo) o
alvo real. Precisa investigação C# mais profunda (timing de
`StartV3OpponentTopDeck`/`lgo_TopDeck` vs `CollectTargetCandidates`, ou
se `RemainingV3Targets` retorna certo pra esse step) — não consigo
avançar mais sem debug ao vivo passo a passo.

**Achado real #3 (NÃO corrigido, precisa aprovação)**: texto oficial da
Mamaragan (cards_rows.csv) é **"Draw 1 card. Then, rest up to 1 of your
opponent's Characters..."** — draw PRIMEIRO, rest DEPOIS (e "up to 1" =
opcional). `card_effects_db.json` tem a ordem **invertida**
(`rest_opp_character` antes de `draw`) — isso pode ser a causa raiz de
por que NEM o draw (sempre executável, sem alvo) acontece: se o
executor tenta resolver o `rest_opp_character` primeiro e trava
esperando alvo (mesmo sendo "up to", o simulador interno lida bem com 0
candidatos — `for _ in range(min(count, len(candidates)))` já é
gracioso — mas o caminho AO VIVO via V3/BotDriver pode não estar). Não
implementado — é mudança de `gerar_effects_db.py`/parser, exige registro
em `parser_audits/` e checagem global da mesma gramática ("Draw X. Then,
rest/KO/bounce up to N...") em outras cartas, conforme regra do CLAUDE.md.
**Aguardando aprovação do usuário antes de implementar.**

**Não investigado a fundo**: "DON em personagem fraco em vez de carta
boa" — hand nas turnos 4-5 mostra Charlotte Linlin (ST34-004, custo 10)
e OP08-069 (custo 9) paradas na mão enquanto DON chegava a 9-10, mas os
snapshots disponíveis não isolam se isso é falta de DON real (custo alto
demais pro turno) ou desperdício genuíno — inconclusivo nesta rodada.

## 2026-07-21 (293) - Claude - regressao propria corrigida (_implied_target classificava peek_opp_deck_top como alvo de personagem) + investigacao da Pudding via codigo decompilado

Continuação direta do bloco 292 (mesma sessão): ao investigar de novo o
travamento antigo da Charlotte Pudding (OP11-070, `activate_main` =
`peek_opp_deck_top`, ciclo de cliques em candidatos inválidos, achado nas
sessões anteriores), achei que o `_implied_target()` que EU MESMO
introduzi no bloco 290 (fix da Mamaragan) tinha um efeito colateral: pra
qualquer ação com `'opp'` no nome mas sem `'target'` explícito, inferia
`'opp_character'` — errado pra `peek_opp_deck_top` (mira o TOPO DO DECK,
não um personagem). Isso classificava a habilidade da Pudding como
`actor_battlefield_only=True` e jogava a zona `top_deck` (onde a carta
revelada de verdade fica) pro FIM da ordem de candidatos — o oposto do
que deveria acontecer. **Fix**: `_implied_target()` só infere lado
(opp/own) quando `'character'`/`'leader'` também aparece no nome da ação
— sem isso, retorna vazio (não arrisca palpite). Teste novo em
[smoke_fast.py](scriptis_da_ia/smoke_fast.py):
`test_peek_opp_deck_top_nao_vira_alvo_battlefield_only`.

**Investigação via código decompilado** (sem partida ao vivo pra
confirmar): achei o mecanismo real de `peek_opp_deck_top` em
`_referencias/simulador-oficial/dnspy-export/Assembly-CSharp/
GameplayLogicScript.cs:27056` (`StartV3OpponentTopDeck`) — o jogo
REALMENTE usa `lgo_TopDeck` (o mesmo campo privado que
`BotExecutor.TopDeck()` já lê via reflection) pra colocar a carta
revelada do deck do oponente, então em teoria a zona `"top_deck"` nos
candidatos DEVERIA conter o alvo certo. `RemainingV3Targets()`
(`BotExecutor.cs:229`) retorna **-1** (não 0) quando a ação não usa V3 —
esse -1 pula o atalho de "confirma direto sem clicar em nada"
(`HandlePendingAction`, linha ~582) e cai na busca de candidato por
candidato. Não consegui confirmar ao vivo se `peek_opp_deck_top` usa V3
de verdade (o nome do método `StartV3OpponentTopDeck` sugere que sim) nem
se o fix de ordenação acima sozinho resolve o problema original — só
achei e corrigi uma regressão real que EU introduzi nesta sessão. **Ainda
precisa de partida ao vivo com Pudding pra confirmar se ela ativa
corretamente agora.**

## 2026-07-21 (292) - Claude - resolve_reaction() generalizada além do Teach (custo de redirect era hardcoded pra "carta da mão")

Continuação direta do bloco 291 (mesma sessão): usuário perguntou se
`resolve_reaction()` era pensada só pro Teach, e citou Doflamingo
(OP14-060) como outro líder com efeito parecido. A ROTEAMENTO da função
já era genérico (não hardcoded a nenhum card code) — mas a CONTA DE CUSTO
do redirect era: `leader_costs = get_card_effects(gs.leader.code).get('on_opp_attack', {})`
(assumia sempre líder + bloco `on_opp_attack`) e `custo_carta = min(_trash_value(c) for c in pool)`
(assumia sempre "custo = perder a carta mais barata da mão"). Confirmado:
Doflamingo tem o MESMO padrão (`on_opp_attack` + `redirect_attack_target`,
`once_per_turn`), mas paga com **1 DON**, não carta da mão. Kid
(ST36-005) tem o redirect via bloco `passive`, **sem custo nenhum**
(sempre de graça). EB01-038 tem via bloco `counter`, custo `don_minus`
OPCIONAL. Nenhum desses 3 seria avaliado corretamente pela conta antiga.

**Fix**: `resolve_reaction()` agora busca em TODOS os blocos do
`actor_code` (não só líder + `on_opp_attack`) qual bloco tem o step
`redirect_attack_target` de verdade (reusa a mesma busca que já faz o
`is_redirect` gate do bloco 291), e computa o custo A PARTIR DOS CUSTOS
DESSE BLOCO especificamente: `trash_from_hand` mantém a régua antiga
(`_trash_value` da carta mais barata, com a guarda de "mão pequena");
`don_minus`/`rest_don` vira `25 * count` (mesmo valor de DON_COST usado
em `_generate_attach_don_actions`); qualquer outro tipo (ou nenhum custo)
não adiciona preço nenhum. Teste novo em
[smoke_fast.py](scriptis_da_ia/smoke_fast.py):
`test_resolve_reaction_custo_de_redirect_e_generico_nao_so_carta_da_mao`
(Doflamingo não é bloqueado pela guarda de "mão pequena"; Kid loga
`custo_carta=0.0`, não o fallback de 25). `smoke_fast.py` e
`smoke_test.py` 100% verdes.

**Ainda não validado ao vivo**: nenhuma das partidas reais até agora
usou Doflamingo/Kid/EB01-038 — o fix é baseado em leitura do
`card_effects_db.json` + teste isolado, não em log de partida real.

## 2026-07-21 (291) - Claude - fix real ao vivo #3: when_attacking/on_opp_attack sempre caiam em resolve_reaction (regua de REDIRECT), Katakuri recusava a propria habilidade quase toda vez; DON de ataque JA aparece na telemetria (correcao de achado anterior, nao precisou de fix)

Continuação direta do bloco 290 (mesma sessão): usuário pediu pra
implementar os dois pontos em aberto — a investigação do `[When
Attacking]`/`[On Opponent's Attack]` do Katakuri, e a observabilidade de
DON alocado em ataque. Usuário também apontou corretamente que o achado
anterior citava só `[When Attacking]`, mas Katakuri tem os DOIS blocos
(`when_attacking` e `on_opp_attack`, idênticos) — os dois precisavam ser
cobertos pelo mesmo fix.

**DON de ataque — achado corrigido do bloco 290, não era bug**: reli
`server.py::/decide` e achei que `donToAttach` já vai no campo `response`
de cada `decision` (`bridge.don_for_attack()`, que já usa
`_don_livre_for_plan` pra não roubar DON do plano do turno — mecanismo já
maduro, várias camadas de fix documentadas no próprio código). O gap era
só que minha investigação anterior olhou `chosen_action` (que não tem
esse campo) em vez de `response` (que tem). Não implementei nada aqui —
seria redundante. Auditoria da lógica de alocação (`don_needed_for_attack`)
não achou bug óbvio; fica como possível pendência SE o sintoma
"distribui DON em vez de descer carta boa" persistir depois dos fixes
abaixo (a hipótese mais provável agora é que era sintoma dos MESMOS bugs
de scoring/execução já corrigidos nesta sessão, não um bug próprio).

**Achado real (causa raiz confirmada, FIX aplicado e genérico)**: o log
mostrou a oferta de custo opcional do Katakuri disparando corretamente
via `IsOfferingDownside`/`ShouldUseOptionalCost` (`BotDriver.cs`) —
`[HB] ... aca=True downside=True mine=True actor=OP11-062` — e o engine
respondendo `Cancel` **7 de 8 vezes**. Causa: `BotDriver.cs` roteia
QUALQUER oferta durante uma janela de ataque (`duringAttack`) pro phase
`"reaction"`, que chama `resolve_reaction()` em
[sim_bridge.py](scriptis_da_ia/optcg_engine/sim_bridge.py) — função
desenhada especificamente pra habilidades de REDIRECT (Teach: "devo
desviar o golpe que vem em mim?"), com a guarda `if atk_power < def_power:
return False` ("não vale se defender de um ataque que já perde
sozinho"). Aplicada ao PRÓPRIO ataque do bot (quando Katakuri usa seu
`[When Attacking]`), essa pergunta fica invertida: um ataque que "já
perde sozinho" é EXATAMENTE o caso onde mais vale pagar 1 DON pra tentar
virar o combate. Mesmo problema pro `[On Opponent's Attack]` (quando o
OPONENTE ataca Katakuri) — outro motor duplicado pra mesma pergunta que
`execute()` (simulador interno) já responde de um jeito diferente (sempre
paga se viável, sem julgar valor, já que `when_attacking`/`on_opp_attack`
nunca passavam pelo crivo de `_worth_paying_optional_costs`).

**Fix (genérico, sem mudança nenhuma em C# — `actorCode` já estava sendo
mandado pelo wire, só não chegava no lugar certo)**:
1. [decision_engine.py](scriptis_da_ia/optcg_engine/decision_engine.py)
   `EffectExecutor.execute()`: o crivo `_worth_paying_optional_costs`
   (já a ÚNICA fonte de verdade pra "vale pagar esse custo opcional",
   usada por on_play/main) agora TAMBÉM roda pra `when_attacking`/
   `on_opp_attack` — simulador interno passa a julgar esses gatilhos em
   vez de sempre pagar.
2. [sim_bridge.py](scriptis_da_ia/optcg_engine/sim_bridge.py)
   `resolve_optional_effect()`: mesma extensão (tupla de triggers
   checados).
3. `resolve_reaction()` ganhou `actor_code`: se a carta NÃO tem
   `redirect_attack_target` de verdade em nenhum bloco, delega pra
   `resolve_optional_effect()` em vez de rodar a lógica de redirect. Teach
   (que TEM `redirect_attack_target`) continua intacto.
4. [server.py](BOT/engine_server/server.py) `/defense` fase `"reaction"`:
   passa `actor_code=req.triggerCode` (campo que já existia no payload,
   só não estava sendo repassado).

Custos de RECURSO (don_minus/rest_don/rest_self, caso do Katakuri) já são
tratados por `_worth_paying_optional_costs` como "sempre vale se pagável"
(só custos de SACRIFÍCIO — mão/campo/vida — exigem julgamento de valor) —
então o fix não precisou de nenhuma régua nova, só parar de pular a
checagem pra esses 2 triggers. Testes novos em
[smoke_fast.py](scriptis_da_ia/smoke_fast.py):
`test_katakuri_when_attacking_custo_don_e_sempre_avaliado_como_valer_a_pena`
(Katakuri usa mesmo perdendo sozinho; Teach continua sendo tratado como
redirect de verdade, não vira sempre-True). `smoke_fast.py` e
`smoke_test.py` 100% verdes.

**Ainda pendente**: validar em partida real que Katakuri passa a usar a
própria habilidade de fato (log deve mostrar "Rest 1 Don"/peek em vez de
"Attack Fails" seco); reconfirmar se "distribui DON em vez de descer
carta boa" ainda aparece depois desses fixes ou se já estava explicado
por eles.

## 2026-07-20 (290) - Claude - fix real ao vivo #2: eventos dual-mode ([Counter]+[Main] com alvos DIFERENTES) misturavam os blocos na ordenacao de alvo, causando ciclo de clique invalido (Mamaragan) + achado aberto (Katakuri [When Attacking] nunca dispara na execucao)

Continuação imediata do bloco 289 (mesma sessão): usuário testou de novo
logo após o restart do `engine_server` com o fix anterior e reportou os
MESMOS 3 sintomas ainda presentes: "líder não usa efeito", "continua
distribuindo DON em vez de descer carta forte", e um novo detalhe
específico — "tá usando o amaragam custo zero com 2 dons ativos e sem
completar o efeito, só trashando a carta". Pedido: "Confira o log".

**Achado real (causa raiz confirmada, FIX aplicado e genérico)**: Mamaragan
(OP15-078, EVENT custo 0) tem `[Counter]` `target=leader_or_character`
(PRÓPRIO) e `[Main]` `rest_opp_character` (SÓ OPONENTE, sem chave
`'target'` explícita — a própria ação já diz o lado). Resolvendo o
`[Main]` em main phase (fora de ataque), `order_target_candidates()` em
[sim_bridge.py](scriptis_da_ia/optcg_engine/sim_bridge.py) misturava os
alvos dos DOIS blocos ao decidir "essa habilidade só mira o oponente?" —
via LogOutput.log, confirmado: o bot clicava `alvo de efeito: OP11-062`
(o PRÓPRIO líder) e `ST34-005` (o PRÓPRIO board) antes de `OP14-050`
(único alvo legal, personagem do oponente), 1 clique por tick, até a
ação expirar e a carta ir pro trash sem o efeito nunca resolver — exatamente
"custo zero, DON ativo, carta só trashada" que o usuário descreveu. Achei
o MESMO padrão reproduzido nessa partida pra **Divine Departure**
(OP13-076) — o fix da sessão anterior (battlefield-only vs trash) não
tinha corrigido essa mistura de blocos, só um sintoma adjacente.

**Fix (genérico, mecanismo compartilhado por TODAS as cartas dual-mode
`[Counter]`+`[Main]`/`[When Attacking]`+outro-bloco com alvos diferentes)**:
`order_target_candidates()` ganhou `_relevant_blocks(actor_code,
attacker_power > 0)` — filtra os blocos do efeito pelo CONTEXTO atual
(`attacker_power > 0` já é o sinal existente de "estamos numa janela de
ataque/counter do oponente"; fora disso, só os blocos não-combate
[`main`, `on_play`, `activate_main` etc.] contam). Aplicado nos 3
detectores que escaneavam "todos os blocos" sem essa distinção:
`actor_opp_only`, `actor_battlefield_only`, `actor_debuff_swing`,
`actor_self_power_target`. Também ganhou `_implied_target(step)` — deriva
o lado (`opp_character`/`own_character`/etc.) do NOME da ação quando não
há `'target'` explícito (convenção `..._opp_...`/`..._own_...` já usada
em várias ações do parser), senão `rest_opp_character` não contribuía
nada pra detecção. Testes novos em
[smoke_fast.py](scriptis_da_ia/smoke_fast.py):
`test_mamaragan_main_so_mira_oponente_apesar_do_counter_mirar_proprio`
(opp_board vem primeiro, own_leader/own_board depois) — verificado também
manualmente que Divine Departure se comporta certo com o mesmo fix.
`smoke_fast.py` e `smoke_test.py` 100% verdes.

**Achado real, AINDA ABERTO (não corrigido)**: Katakuri (líder OP11-062)
tem `[When Attacking]` (+1000 power self, `peek_opp_deck_top`, custo
`don_minus:1`) — o `vale_restar` que justifica o bot atacar mesmo sem
chance de vencer (bloco 289) ASSUME que esse gatilho dispara. Grep no
combat log dessa partida: **nenhuma das 4 vezes que Katakuri atacou** tem
a linha esperada de custo/efeito ("Rest 1 Don", peek) — o gatilho nunca
resolve de verdade na execução, só na intenção do score. Mesma FAMÍLIA de
bug que a Mamaragan (habilidade com custo opcional que não completa na
execução), mas no caminho de ATAQUE (não existe um `GameplayState`
dedicado pra isso — teria que ser uma confirmação inline durante
`Attack_WaitOnBlocker`/`Attack_BeforeBlocker` não tratada em
`BotDriver.cs`). Precisa de investigação C#/estado do jogo antes de
mexer — não teve tempo nesta sessão.

**Ainda não investigado**: "continua distribuindo DON em vez de descer
carta forte" — DON anexado durante um ATAQUE vai embutido no parâmetro
`donToAttach` da própria ação `attack` (não aparece como decisão
`attach_don` separada na telemetria), então a wave anterior de
investigação (procurando decisões `attach_don` pra explicar o excesso de
DON na Pudding, bloco 289) pode ter olhado o lugar errado — o real
mecanismo de alocação de DON pra ataque ainda não foi auditado.

## 2026-07-20 (289) - Claude - fix real ao vivo: ataque sem chance de conectar pontuava alto por causa do gatilho [When Attacking] do próprio atacante + Divine Departure (order_target_candidates) commitado + achados abertos (Pudding, DON parado em char de poder 0, client_timeout, latência 169s)

Continuação da sessão 288: usuário jogou mais uma partida (após restart de
`engine_server`+plugin feito por mim) e reportou 3 problemas observados:
"líder não usa efeito", "líder ataca 5000 num personagem 7000", "DON
empilhado num personagem de poder 0 em vez de jogar carta boa". Pedido
explícito: analisar log+telemetria e reportar antes de corrigir; depois
"pode corrigir, mas lembre-se que tem que ser uma forma do bot pensar e
não uma alteração exclusiva do deck do Katakuri".

**Achado real #1 (causa raiz confirmada, FIX aplicado e genérico)**: no
turno 4, com `activeDon: 0`, o bot atacou com o líder Charlotte Katakuri
(OP11-062, 5000) contra Dracule Mihawk (ST32-003, 7000) — ataque
matematicamente impossível de conectar. `score_attack_target()`
([decision_engine.py](scriptis_da_ia/optcg_engine/decision_engine.py))
tem a regra dura "só ataca se mata (com/sem DON) OU se restar ativa um
efeito útil" (`vale_restar`, via `_rest_activates_effect`). Katakuri tem
`[When Attacking]` (+1000 power self, `peek_opp_deck_top`, custo 1 DON) —
isso faz `vale_restar=True` e o ataque passa da barreira, correto até aí.
O BUG: depois de passar, o código somava os bônus de "vale matar o alvo"
(`board_value()*15`, +50 alvo com efeito, +70 nega ameaça, +60 blocker
etc.) **mesmo sem nenhuma chance real de matar**, inflando o score pra
405 — acima até de ataques que realmente conectam. Isso também explica o
relato #1 ("líder não usa efeito"): o efeito É o `[When Attacking]`, o bot
estava tentando usá-lo (atacando), só que o ataque nunca conectava, então
não sobrava nada visível pro usuário perceber.

**Fix (genérico, não amarrado ao Katakuri/deck nenhum)**: em
`score_attack_target` (ramos `'leader'` e `'character'`), quando o ataque
não tem chance de conectar (`not pode_matar`) mas passa só por
`vale_restar`, o score agora vem exclusivamente de
`_rest_only_attack_value(attacker)` — nova função que deriva o valor
**do que o `[When Attacking]` do PRÓPRIO atacante realmente faz**
(remoção/controle, vantagem de carta, buff de poder, ou piso genérico),
olhando os `steps` do efeito estruturado, igual ao padrão que
`_trigger_don_value` já usa em `OPTCGMatch` — funciona pra qualquer carta
com essa forma (quando_attacking + poder insuficiente), não só Katakuri.
Os bônus de remoção de alvo (`board_value`, nega ameaça, blocker/rush/
double_attack) só se aplicam quando o ataque **tem** chance real de
matar. Teste novo em
[smoke_fast.py](scriptis_da_ia/smoke_fast.py):
`test_ataque_sem_chance_de_conectar_nao_ganha_bonus_de_matar_alvo` —
confirma score cai de 405→60 no caso sem chance, e que um ataque que
realmente mata ainda pontua mais (80) que o que só ativa o gatilho.
`smoke_fast.py` E `smoke_test.py` (regressão ampla, rodado por tocar
código compartilhado) 100% verdes.

**Achado real #2 (aberto, NÃO corrigido)**: Pudding (OP11-070, 0 power)
ficou com **7 DON anexados** a partir do turno 5, parada, enquanto o bot
tinha `ST34-004 x2`/`OP11-073`/`OP11-067` (8k-12k power) sem jogar na
mão. A via legítima que anexa DON nela (`_generate_attach_don_actions`,
`don_requirement: 1` no `activate_main` dela) só deveria colocar 1 DON e
parar (guard `card.don_attached >= req: continue`) — não achei nenhuma
decisão `attach_don` nos 106 decisions logados que explique os outros 6.
Suspeita: ligado ao mesmo travamento do `activate_main` dela
(`peek_opp_deck_top` nunca resolve o alvo — ciclo de 12+ candidatos sem
sucesso, achado na sessão 288, o fix de `ConfirmRevealedCard` daquela
sessão NÃO resolveu isso, confirmado ao vivo que o estado nunca dispara
pra essa carta). Precisa de mais investigação antes de mexer.

**Pendente, não investigado ainda**: `client_timeouts: 1` (primeira vez
que aparece) e `latency max: 169609ms` (169s) nessa mesma sessão de
telemetria (`decisions_2026-07-20T16.45.37.jsonl`).

**Divine Departure / order_target_candidates**: fix da sessão anterior
(alvo battlefield-only nunca perde pro próprio trash/mão/topo do deck do
ATACANTE na ordenação de candidatos) estava pronto mas não commitado —
commitado nesta sessão junto com o fix acima.

## 2026-07-20 (288) - Claude - banco de cartas: sets ST31-36 adicionados (transcritos manualmente) + fix real achado em partida ao vivo (ConfirmRevealedCard)

Primeira sessão de teste ao vivo de verdade desde os fixes dos blocos
285-287 (usuário rodou `engine_server` + jogou partidas reais). Resultado
imediato: **os fixes de captura de log (bloco 286) funcionaram 100%** —
`DownloadLogLines()` gerou logs completos com `GameOver`, a coleta
automática funcionou, `winner` foi preenchido corretamente. 3 partidas
jogadas no total (a 1ª sem o servidor rodando — bot 100% passivo, log
removido do banco a pedido do usuário por não ter decisão real nenhuma;
as 2 seguintes com o servidor ativo).

**Achado real #1 — bug de execução, causa raiz confirmada por leitura do
jogo decompilado**: 69% das decisões de Main Phase (20/29) falhavam na
2ª partida, todas a mesma carta (Charlotte Pudding OP11-070,
`activate_main` = "peek_opp_deck_top" com custo `rest_self`). O clique de
ativar "funcionava" no C#, mas o jogo entra num estado dedicado
(`GameplayState.ConfirmRevealedCard`, achado em
`_referencias/simulador-oficial/dnspy-export/.../GameplayLogicScript.cs`)
esperando confirmação — sem handler nenhum no `BotDriver.cs`, o popup
nunca fechava, o custo nunca comitava, e o engine reoferecia a mesma
ativação pra sempre. **Fix genérico** (não específico da Pudding —
qualquer carta com efeito "olhar/revelar sem escolha" bateria no mesmo
buraco): novo handler em `BotDriver.cs` que confirma automaticamente
(`ButtonChoiceType.ConfirmRevealedCard`), mesmo padrão simples do
DrawCard/DrawDon. **Validado em partida real nova**: 16 decisões de Main
na 3ª partida, **zero falhas** (vs. 20/29 antes do fix).

**Achado real #2 — dado ausente, não lógica**: a mesma partida mostrou o
bot com cartas fortes na mão (ST34-001/002/004 etc.) que NUNCA apareciam
em `scored_actions` — a mão tinha as cartas, mas o motor as via como se
não existissem. Causa raiz: `server.py::_dto_to_gs` filtra
silenciosamente qualquer carta cujo código não esteja em `cards_db`
(`gs.hand = [c for c in (_make(d) for d in player.hand) if c]`,
`_make()` retorna `None` pra código desconhecido). Confirmado: os sets
ST31-36 (lançados este mês) estavam 100% ausentes do `cards_rows.csv`.
Isso, mais que qualquer bug de scoring, explica o padrão relatado pelo
usuário (não desceu carta forte, anexou DON e atacou em vez de
desenvolver, todos os ataques counterados) — com as cartas boas
invisíveis, "atacar com tudo" virava genuinamente a melhor opção que o
motor conseguia ver.

**Fontes automáticas (`optcgapi.com`/`apitcg.com`, endpoint
`/api/sync-cards`) ainda não têm ST31-36** (confirmado ao vivo:
`optcgapi.com` só vai até ST30; `apitcg.com` retornou erro 500).
Descoberta lateral: o projeto Supabase estava **pausado** (plano free
pausa por inatividade) — reativado pelo usuário durante a sessão; o
front-end de produção também estava fora do ar até esse momento, não só a
sincronização de cartas. Rodada a sincronização depois de reativar: 4152
cartas atualizadas via `optcgapi.com`, 0 erros (mas sem ST31-36, confirmando
o gap).

**As 30 cartas exclusivas dos 6 starter decks (5 por deck + 1 stage no
ST31) foram transcritas manualmente** direto das imagens locais do jogo
(`E:\Games\OnePieceSimulador\Builds_Windows\OPTCGSim_Data\StreamingAssets
\Cards\ST3{1..6}\` — só imagens, sem arquivo de dados; `Cards.rar` do
mesmo diretório também só tem imagens e só vai até ST30, mesmo gap).
Líderes desses decks são reaproveitados de sets antigos (já no banco,
confirmado — ex. OP11-062 Charlotte Katakuri no ST34). Custo/poder/cor/
atributo/subtipos/counter/texto lidos carta a carta na imagem oficial.
`card_image` ficou vazio (sem URL hospedada — só afeta exibição no
front-end, não o engine) e `set_name` é descrição provisória (título
oficial em inglês não confirmado). Ressalva: atributo de ST34-002
(Charlotte Cracker) foi lido como "Wisdom" por inferência (ícone ambíguo
na arte, possivelmente pré-lançamento) — vale reconferir quando a carta
sair oficial. Registro completo em
`parser_audits/2026-07-20_st31_a_st36_cartas_novas_adicionadas.json`.

Validado: `diff_parser.py` PERDEU=0 (GANHOU=0 é esperado — a ferramenta só
compara códigos que já existiam no snapshot anterior, não detecta carta
nova; confirmei manualmente que as 30 estão em `card_effects_db.json` com
efeitos extraídos). `smoke_fast.py`/`smoke_test.py` 100% verde. `dotnet
build` limpo pro fix do `BotDriver.cs`.

Arquivos tocados: `BOT/OPTCGBotPlugin/BotDriver.cs`,
`scriptis_da_ia/cards_rows.csv`, `card_effects_db.json`,
`card_analysis_db.json`, `parser_snapshot.json`, novo
`parser_audits/2026-07-20_st31_a_st36_cartas_novas_adicionadas.json`.
3 combat logs reais de hoje adicionados ao banco (`logs/raw|parsed|decks`
+ `index.json`, 79 → 82 entradas — 1 removida a pedido do usuário por bot
100% passivo, servidor offline).

**Pendências**: `setup_bepinex.bat` precisa rodar de novo (fix do
`BotDriver.cs` já compilado, falta reinstalar a DLL) antes da próxima
partida contar como validação plena. Confirmar via partida nova que o
bug da Pudding realmente não volta em outras cartas do mesmo padrão
(qualquer "look"/"peek" sem escolha). LETHAL/PREVENT_COMBO ainda não
exercitados em partida real (nenhuma das 3 chegou nesses cenários).

## 2026-07-19 (287) - Claude - consciência de combo estratégico do oponente (tópico aberto 07/07, blocos 99/100) — implementado

Retomando o tópico "PRÓXIMO TÓPICO" do TODO.md (aberto 07/07, nunca
escopado): 4 partidas reais daquela sessão foram perdidas pro mesmo padrão
— oponente (Five Elders/Imu) empilha corpos fortes no trash e reanima
tudo de uma vez, virando o jogo. Nenhum fix tático daquela sessão atacava
isso porque `critical_threats()` só olha o board ATUAL, nunca o trash.

**Nota**: os 4 logs de 07/07 que o TODO pedia pra reler não existem mais
(eram arquivos locais nunca adicionados ao banco — violação da regra
"OBRIGATÓRIO salvar" do `CLAUDE.md`, gap de processo daquela sessão).
Trabalhado em cima da descrição detalhada já registrada em HANDOFF 99/100.

**Implementado, tudo dentro de `decision_engine.py` — sem motor novo**:

1. **`GameAnalyzer.opp_combo_threat()`** (nova): escaneia líder + board do
   oponente por steps `play_from_trash`/`add_from_trash` com `count>=2`,
   casa o filtro de combustível (`filter_type`/`power_eq`/`distinct_names`)
   contra o trash real dele. Retorna `{magnitude, threat_power, sources}`.
   Mesma matemática do eixo `reanimation_bottleneck` de `deck_profile.py`
   (min(capacidade, combustível qualificado)), aplicada ao OPONENTE. **Não
   depende de decklist dele** — líder é sempre público desde o T1, board
   idem assim que jogado, e `get_card_effects` é estático por código.
   Validado isolado com o cenário exato do Five Elders (OP13-082,
   `play_from_trash count=5 power_eq=5000 filter_type="five elders"`) e
   casos negativos (sem a carta, só 1 corpo qualificado).
2. **Nova prioridade `PREVENT_COMBO`** em `analysis_priority()` (entre
   `DEFENSIVE` e `REMOVE_THREAT`), dispara com `magnitude>=2`. Bias de
   score: ataque ao líder +150 (corre o clock antes da virada, menos que
   os +500 do LETHAL) e cartas defensivas (blocker/counter) +80 (guarda
   recurso pro turno dele, menos que os +120 do DEFENSIVE).
3. **Termo simétrico em `_evaluate_state_v2`**: novo peso
   `opp_combo_threat` (0.8, mesma escala de `board_opp`) penaliza pelo
   `threat_power` do estado avaliado — linhas que reduzem o combustível
   qualificado do oponente (ex: sujam o trash dele) recomputam ameaça
   menor, então a busca do Turn Planner já prefere isso sem regra
   hardcoded nenhuma (mesmo princípio de `wincon_ready`/`opp_blocker`).
4. Logado em 2 lugares pra auditoria futura: `_log_turn_planner_decision`
   (offline, `context.opp_combo_threat`) e ao vivo no `/decide`
   (`trace_out`/`decision` JSONL, mesmo padrão de `priority`/`can_lethal`
   do bloco 286) + `[ALERTA]` no console do proxy quando `magnitude>=2`.

**Validado**: teste novo em `smoke_fast.py`
(`test_opp_combo_threat_detects_five_elders_style_reanimation`, 5 checks)
+ `smoke_fast.py`/`smoke_test.py` 100% verde (mudança em código
compartilhado, rodou a regressão ampla na hora). Confirmado em self-play
real (não só teste isolado): `audit_decision_quality.py --n 8 --seed 7`
mostra `PREVENT_COMBO: 8` em 276 decisões — o sinal dispara em jogo de
verdade, com deck de Imu no pool.

**Não implementado (fora de escopo desta rodada, deliberado)**: bônus de
score específico pra ações que removem o combustível exato do oponente
(`opp_place_trash_bottom_deck` já existe no motor, mas hoje pontua
genérico "pior carta", não sabe mirar o combustível da combo detectada) —
a pressão emergente do termo em `_evaluate_state_v2` já cobre isso
indiretamente (qualquer linha que reduza o trash qualificado do oponente
pontua melhor), decidido não hardcodar em cima disso sem medir se falta
de verdade. **Precisa de calibração** (limiar `magnitude>=2`, pesos
150/80/0.8) via self-play com seeds fixos, mesmo protocolo maximin do
bloco 285 — ainda não medido formalmente.

Arquivos tocados: `scriptis_da_ia/optcg_engine/decision_engine.py`,
`scriptis_da_ia/optcg_engine/sim_bridge.py`, `BOT/engine_server/server.py`,
`scriptis_da_ia/smoke_fast.py`.

## 2026-07-19 (286) - Claude - proxy: sinais de "bot confuso"/timeout ao vivo + LETHAL correlacionado com outcome + log completo (sem corte do AutoSaved)

Depois do fix de eficiência (bloco 285), usuário pediu levantamento do que
falta no proxy + uma função pra mostrar erros ("bot ficou sem saber o que
fazer", "pensou demais"). Levantamento (via Explore agent) achou: timeout
já existe mas fica indistinguível de qualquer outro erro de rede; `/decide`
sem ação elegível já é logado mas nunca vira alerta; `decision_error`
(exceção Python real) é um tipo de evento que `bot_efficiency_report.py`
**nunca lia**; ação repetida 3x/2 falhas seguidas do `BotDriver.cs` já
reportava `execution failed`, mas só aparecia como aviso solto na Unity,
nunca com marcador claro no mesmo terminal do proxy. Implementados os 4
itens acordados + os 2 itens de telemetria/captura de log já propostos
antes:

**1. `sim_bridge.choose_action` ganhou `priority`/`can_lethal` no
`trace_out`** (calculado uma vez via `engine.analyzer`, sem custo extra) —
fecha o cruzamento "esse turno certificou lethal e a partida realmente
terminou logo em seguida?" **direto no JSONL de produção**, sem precisar
reconstruir estado de combat log (que sofre o corte do AutoSaved, ver
bloco 285). Achado extra na mesma leitura: a exceção dentro da thread de
busca (`_run()`) era engolida silenciosamente (só `print`, nunca chegava em
`trace_out` nem telemetria) — `server.py` via "sem ação elegível",
indistinguível de um turno legitimamente sem jogada. Corrigido: agora vira
`trace_out["engine_error"]`.

**2. `server.py`**: `/decide` agora grava `priority`/`can_lethal`/
`engine_error` no evento `decision`; `decision_error` ganhou `match_id`
(faltava, impedia correlacionar com o outcome). Novo endpoint
`/client_timeout` (evento novo, `client_timeout`) pro plugin C# reportar
quando o `HttpClient` estoura o timeout de 10s esperando QUALQUER endpoint
— antes disso um timeout de rede real não deixava rastro NENHUM em
telemetria (nem `decision` nem `execution` saíam, o request nunca
completava). Marcadores `[ALERTA]` ao vivo no console (mesmo
`session_*.log` do `_TeeStream`) pra: engine_error, sem ação elegível,
timeout interno da busca, exceção real no `/decide`, e execução `failed`
(cobre os casos que o C# já detectava mas só avisava na Unity).

**3. `EngineClient.cs`**: `catch (TaskCanceledException)` específico (antes
do `catch (Exception)` genérico) em `Decide`/`Defense`/`ChooseTarget`/
`ShouldMulligan`/`GoFirst`, cada um chamando `ReportClientTimeout(endpoint,
turn)` — fire-and-forget pro `/client_timeout` novo.

**4. `bot_efficiency_report.py`**: novo alerta agregado `bot_confusion`
(soma `no_eligible_action` + `decision_error` + `client_timeout` +
"execução travada" — ação repetida 3x/`ExecuteOne` falhou, via texto do
campo `error` da execução). Novo `lethal_certified_summary`: agrupa por
`match_id` o primeiro turno com `can_lethal=True` e correlaciona com o
evento `outcome` da mesma partida (via `state_final.turnNumber`) —
`matches_closed_after_lethal`/`matches_not_closed_after_lethal`/
`mean_turns_to_close`. 3 testes novos em `test_bot_efficiency_report.py`
(13/13 passam).

**5. Achado extra, por leitura do decompilado
`_referencias/simulador-oficial/dnspy-export/.../GameplayLogicScript.cs`**:
o combat log com o desfecho COMPLETO ("Downloaded the Combat Log!"/
"GameOver") só existe se `DownloadLogLines()` for chamado — normalmente só
acontece quando o jogador clica o botão "Download Log" na tela de fim de
jogo. O bot nunca clicava nele; o coletor só via `CombatLogs/AutoSaved/`
(escrito por `SaveMyLogLines`, autosave contínuo que corta bem antes do
fim — confirmado 5/5 nos logs do bloco 285). Fix: `BotDriver.cs` chama
`gls.DownloadLogLines()` diretamente (método público, sem precisar simular
clique de UI) no `GameOver`, antes de reportar o outcome — escreve o log
cheio em `CombatLogs/<timestamp>.log`. `collect_latest_match.py` mudou o
diretório padrão de busca de `CombatLogs/AutoSaved` pra `CombatLogs`
(pasta pai). **Precisa validação em partida real** (não declarar
resolvido sem log ao vivo) — a próxima partida deve confirmar que o
`.log` capturado agora tem as linhas de `GameOver`.

Validado: `smoke_fast.py` 100% verde, `test_bot_efficiency_report.py`
13/13, `dotnet build` limpo (0 erros/avisos novos). Arquivos tocados:
`scriptis_da_ia/optcg_engine/sim_bridge.py`, `BOT/engine_server/server.py`,
`BOT/OPTCGBotPlugin/EngineClient.cs`, `BOT/OPTCGBotPlugin/BotDriver.cs`,
`scriptis_da_ia/collect_latest_match.py`,
`scriptis_da_ia/bot_efficiency_report.py`,
`scriptis_da_ia/test_bot_efficiency_report.py`.

## 2026-07-19 (285) - Claude - eficiência do bot: mapeamento do Turn Planner + fix real de LETHAL/DON validado

Depois de fechar a varredura do parser e o proxy/telemetria (bloco 284),
usuário pediu pra investigar como o motor toma decisão e melhorar
eficiência — mas com o recorte certo primeiro: "melhorar como o bot decide"
é mexer no `decision_engine.py` (o cérebro), não no `bot_optcgsim.py`
(olhos/mãos), regra já registrada em `feedback_dois_motores.md`.

**1. Documento de auditoria criado**: `scriptis_da_ia/GUIA_AUDITORIA_
DECISOES.md` — mapeia score imediato vs. valor simulado, as duas noções de
"modo do turno" (`analysis_priority()` vs `posture()`, fácil confundir),
`can_lethal_this_turn()` (determinístico) vs `opp_lethal_threat()`
(heurística probabilística), o loop completo do Turn Planner
(`main_phase`), `_simulate_sequence_once` (Monte Carlo + busca de resposta
do oponente), a tabela real de pesos de `_evaluate_state_v2` (achado:
`wincon_ready` nunca foi tunado, único peso sem entrada em
`eval_weights.json`), e o glossário exato dos campos do log de auditoria
(`score`/`sim`/`win=W/S`). Serve de referência pra qualquer sessão futura
auditar decisão sem rederivar tudo.

**2. Achado real, confirmado por instrumentação (não só leitura de
código)**: rodando `audit_decision_quality.py --n 8 --seed 7`, 4 de 5
"overrides grandes" com `priority=LETHAL` mostravam TODAS as linhas
simuladas com `win=0/3` — ou seja, o motor certificava lethal garantido mas
nenhuma simulação fechava o jogo. Um caso de controle na mesma amostra (T13
PB) provou que a detecção de vitória funciona quando deveria (ataque óbvio
perde a simulação, alternativa fecha 3/3) — o problema não é a maquinaria,
é específico de certos estados.

**Causa raiz identificada e CONFIRMADA por instrumentação dedicada**:
`can_lethal_this_turn()` certifica lethal alocando livremente TODO o DON
disponível entre os ataques (busca sem restrição). Mas a execução real
(`_don_livre_for_plan`) reservava DON pro "resto do plano do turno" mesmo
quando o lethal certificado já tornava esse resto irrelevante. Novo script
`scriptis_da_ia/diag_lethal_don_alloc.py` (monkeypatcha
`GameAnalyzer.analysis_priority` com trava de reentrância — sem ela, a
instrumentação reentra nela mesma via `_don_livre_for_plan` chamando
`_generate_and_score_actions` de novo, travou o processo por quase 1h antes
de eu perceber e matar) mediu em 3 partidas reais: **82,4% (1165/1413) dos
momentos com lethal certificado tinham a alocação real de DON MENOR que a
certificada.**

**Fix aplicado**, atrás de `FIX_LETHAL_DON_ALLOCATION` (default `True`,
mesmo padrão de `USE_EVAL_V2`): `_don_livre_for_plan` agora devolve
`p.don_available` inteiro quando `can_lethal_this_turn()` é `True` — sem
reservar nada pro plano. Mudança aditiva em `can_lethal_this_turn()`
(refatorada pra `_lethal_search()` + novo `can_lethal_this_turn_alloc()`
que expõe a alocação, antes descartada) sem alterar o `bool` retornado.

**Validação**: `smoke_fast.py`/`smoke_test.py` 100% verde (precisou
corrigir 1 teste existente, `test_don_reservado_para_ativar_wincon_em_
campo`, cujo `opp` tinha `life=[]` por omissão — certificava lethal
trivial e mascarava o que o teste realmente validava; corrigido com vida
realista). Reexecutando o diagnóstico: gap caiu de 82,4% pra 39,4%
(resíduo provavelmente é ruído do script — a alocação "certificada" não é
a mínima, só uma que funciona).

**Medição pareada** (`scriptis_da_ia/measure_lethal_don_fix.py`, mesmo
padrão de `tune_weights.py`: self-play determinístico, `PYTHONHASHSEED=0`,
mesma seed nos 2 lados, MC=4, N=20/matchup): Krieg 0,55→0,60 (+0,05), Kid
0,50→0,75 (**+0,25**), Teach 0,95→0,90 (−0,05). Maximin=−0,05 — reprova
pela regra estrita do `tune_weights.py`, MAS: Teach já estava perto do teto
(pouco espaço pra subir, −0,05 é 1 partida em 20), Kid +0,25 é sinal forte
(5 partidas), e **turnos médios até fechar caíram nos 3 matchups sem
exceção** (efeito mecânico esperado do fix). **Decisão do usuário: aceitar
o fix como está** (seguro, reversível via flag, passa todos os smokes) e
deixar a confirmação mais fina vir organicamente dos logs ao vivo conforme
acumularem — não rodar N=50 isolado no Teach agora.

**Cruzamento com os 79 logs reais — BLOQUEADO estruturalmente, não por
falta de busca**: dos 42 logs gravados pelo bot (identificáveis por
p1.name=="You"/p2.name=="Opponent", diferente de logs humano-vs-humano com
handles reais), só 5 chegam a registrar o oponente em vida ≤2 — e os 5
terminam EXATAMENTE naquele turno, sem nenhum turno extra gravado depois.
Confirma o que o bloco 267 já documentou (AutoSaved corta as linhas finais
antes de GameOver) — não dá pra validar o padrão de "motor preso tentando
fechar" nesses 79 logs porque a captura corta antes do desfecho, em TODOS
os 5 casos próximos do fim, sem exceção. Só uma partida ao vivo nova
(usando `CombatLogs` manual, não AutoSaved, ou confiando no fix de
`winner`/telemetria do bloco 284) vai dar visibilidade real do final.

Arquivos novos: `scriptis_da_ia/GUIA_AUDITORIA_DECISOES.md`,
`scriptis_da_ia/diag_lethal_don_alloc.py`,
`scriptis_da_ia/measure_lethal_don_fix.py`. Arquivos tocados:
`scriptis_da_ia/optcg_engine/decision_engine.py` (refactor aditivo +
fix), `scriptis_da_ia/smoke_fast.py` (1 teste corrigido).

## 2026-07-19 (284) - Claude - retomada do proxy/telemetria: as 3 pendências do bloco 267/268 endereçadas

Varredura do parser fechou em 100 suspeitos (bloco 283) — usuário autorizou
retomar as 3 pendências do proxy que estavam adiadas desde 18/07 (bloco
268). Diagnóstico e fix feitos **sem partida nova**: o decision log bruto da
partida ao vivo de 18/07 (`BOT/engine_server/logs/decisions/decisions_
2026-07-18T02.23.28.jsonl`, 2MB) ainda existia em disco, o que permitiu
investigar as 3 falhas reais linha a linha em vez de só hipotetizar.

**1. `semantic_transition_failed` (3 casos) — 2 falsos-positivos + 1 alerta
duplicado, corrigido em `bot_efficiency_report.py`:**
- 2 dos 3 eram `activate` de OP15-026 (Jango): `[Activate: Main] You may
  trash this Character: ...` — o custo é trashar a PRÓPRIA carta, então ela
  correta e esperadamente some do board depois. O checker `main_transition_ok`
  só sabia reconhecer `activate` como "card com actionUsed=True", nunca
  contemplando custo de auto-trash — tratava ausência da carta como falha.
  Fix: se a carta não é mais encontrada após um `activate` que antes existia,
  considerar sucesso (`before_card is not None and after_card is None`).
- O 3º caso era um `activate` cujo `terminal.status` já era `"failed"` (DTO
  idêntico antes/depois) — a checagem semântica rodava em cima de uma
  execução JÁ conhecida como falha, gerando um 2º alerta redundante sem
  informação nova. Fix: só avaliar `main_transition_ok` quando
  `terminal.status == "confirmed"`.
- Validado: `test_bot_efficiency_report.py` 10/10 OK; reprocessei o JSONL real
  de 18/07 com `--decision-log` e `semantic_transition_failed` sumiu do
  relatório (só sobraram os 2 alertas reais abaixo).

**2. `state_after_coverage_pct` 88,5% / 12 de 38 `target` pendentes para
sempre — causa raiz real encontrada por leitura estática do
`BotDriver.cs` (`HandlePendingAction`), não é race condition:** o branch
"V3 sem alvos faltando" (`remaining == 0` → `ConfirmPendingSelection()` +
`return`) fica ANTES do bloco de clique que é o ÚNICO lugar que chamava
`TrackAuxDecision(_pendingTargetDecisionId, ...)` (reporta `sent` pro
engine). Sempre que um novo `ChooseTarget` é pedido no reset do prompt E o
efeito já não tem mais alvo faltando nesse mesmo tick, o código confirma e
retorna sem NUNCA reportar o decisionId recém-recebido — a decisão python
fica com 0 eventos de execução, presa em `pending` para sempre (exatamente
o padrão visto no log: uma decisão `target` órfã com o MESMO `n_ord` de uma
confirmada poucos décimos de segundo antes). Fix: reportar `sent` com o
estado atual antes do `ConfirmPendingSelection()`/`return`, igual já era
feito no bloco de clique. `dotnet build` limpo (só warnings pré-existentes
não relacionados). **Precisa validação em partida real** (não declarar
resolvido sem log ao vivo, ver `feedback_nao_declarar_resolvido_sem_
partida_real.md`) — próxima sessão que testar ao vivo deve conferir se
`state_after_coverage_pct` sobe pra ≥95%.

**3. `winner: null` cosmético em `logs/index.json`:** causa raiz real —
o combat log baixado pelo AutoSaved é sempre cortado ANTES das linhas
`Downloaded the Combat Log!`/`GameOver` (achado já documentado no bloco
267), então `parse_combat_log.py` genuinely não tem como saber quem venceu
só pelo texto do log. Mas o `/outcome` do `server.py` JÁ recebe
`report.result` (win/loss) na hora de chamar `collect_latest_match.
collect_latest()` — só não estava sendo repassado. Fix: `collect_latest()`
ganhou parâmetro `result`; nova `_apply_winner()` mapeia
`win→"p1"/loss→"p2"` no index (p1 é sempre "You"/bot e p2 sempre
"Opponent", confirmado via `RE_LEADER` — convenção do próprio formato do
combat log do jogo, não inventada agora). `server.py` passa `report.result`
adiante; `collect_latest_match.py` também ganhou `--result win|loss`
opcional pro fallback manual (`/outcome` nunca disparar de novo). Testado
isolado com `copy.deepcopy` do `logs/index.json` real (sem mutar o arquivo)
confirmando o mapeamento win→p1/loss→p2; `index.json` real intacto.

Arquivos tocados: `scriptis_da_ia/bot_efficiency_report.py`,
`scriptis_da_ia/collect_latest_match.py`, `BOT/engine_server/server.py`,
`BOT/OPTCGBotPlugin/BotDriver.cs`. Nenhum código de carta/parser tocado
(fora do escopo desta sessão). Próximo passo real: rodar
`BOT\setup_bepinex.bat` (recompila com a mudança do BotDriver.cs) e jogar
≥1 partida ao vivo pra confirmar os 3 gates + calibração 20-50 partidas
ainda pendente do bloco 267 original.

## 2026-07-19 (283) - Claude - fotos de cartas (OP15-047/OP16-095/OP15-074) + dívida técnica "in any order" + mecanismos deliberadamente deferidos

Usuário mandou fotos de 3 cartas pra fechar dúvidas antigas do parser, e
pediu explicitamente: além de corrigir essas 3, corrigir a dívida
técnica "in any order" registrada em 16/07 e implementar TODOS os
mecanismos conhecidos deliberadamente não implementados (EB04-011,
OP12-016 Rayleigh, OP04-069, OP16-032, OP09-097/OP02-089/OP04-017).
Trabalho seguiu o protocolo completo (censo global → fix genérico →
`diff_parser.py` PERDEU=0 → `gerar_dbs.py` → `snapshot_parser.py` →
`smoke_fast.py`/`smoke_test.py` novos testes → `smoke_test_broad.py` a
cada fix que toca código compartilhado → registro em `parser_audits/`)
pra cada item, um de cada vez.

**Fixes reais (bug confirmado + corrigido):**
1. **OP15-047 (Sanji)/OP16-095 (Luffy) — `select_grant_unblockable_turn`
   sem filtro/com cor:** foto confirmou que ambas fazem SELEÇÃO real
   (não auto-concessão). Bug de 2 camadas: regex interno exigia
   delimitador de tipo obrigatório (sem suportar "sem filtro" nem prefixo
   de cor) E um GATE EXTERNO em `parse_block` só chamava a função se o
   texto tivesse o substring literal "type character" (OP15-047 não tem
   — sem filtro). Corrigidas as 2 camadas + `eligible_cards` no engine
   ganhou `color=`. Censo confirmou Rush/Blocker/Double Attack já
   suportavam "sem filtro" corretamente (só Unblockable tinha o bug de 2
   camadas, por ter uma sub-função dedicada com gate próprio). `diff_parser.py`
   MUDOU=2 (só as 2 cartas). Ver
   `parser_audits/2026-07-19_select_grant_unblockable_sem_filtro_e_gate_externo.json`.
2. **EB04-011 (Scaled Neptunian) — draw dinâmico por contagem de tipo:**
   "Draw a card for each of your {Neptunian} type Characters. Then,
   trash the same number of cards from your hand" — 1 carta no banco
   (isolado). Novo `count_source='own_field_type_count'` +
   `then_trash_same_as_drawn` no action `draw` (parser e engine).
   `diff_parser.py` MUDOU=1.
3. **OP04-069 (Mr.2.Bon.Kurei) — base power = power do atacante do
   oponente:** "[On Your Opponent's Attack]... becomes the same as the
   power of your opponent's attacking Leader or Character" — distinto de
   `source='opp_leader'` (sempre o Leader, não quem ataca). Exigiu
   contexto de batalha novo: `EffectExecutor.execute(battle_attacker=...)`,
   preenchido no único call site real de resolução de ataque, consumido
   por `set_base_power/source='opp_attacking_character'`. `diff_parser.py`
   MUDOU=1.
4. **Dívida técnica "in any order" (bottom-deck) fechada:**
   `place_from_trash_bottom_deck` (custo) escolhia via `candidatos.pop()`
   sem critério de ORDEM — 25 cartas reais com `count>1` afetadas (Kaku
   OP07-080, etc). Fix: preserva a SELEÇÃO original (mesmos `count`
   cards escolhidos — mudar isso quebrou OP05-088 Mansherry, que
   recupera outra carta específica do MESMO trash no mesmo bloco), só
   corrige a ORDEM de inserção (mais forte fica mais perto do topo).
   Achado colateral: mesmo bug de ordem no CUSTO
   `place_own_character_bottom_deck` (0 cartas reais com count>1 hoje,
   fix preventivo). `deck_reorder_rest` já estava correto desde 01/07.
5. **Counter events com 2 debuffs/negate_effect (OP04-017/OP09-097):**
   `_counter_event_debuff_plan` exigia EXATAMENTE 1 step — generalizado
   pra somar todo `debuff_power` aplicável no bloco (mesmo alvo = o
   atacante, única leitura sem ambiguidade real), ignorando
   `negate_effect` combinado. Achado colateral: condição "if your Leader
   is active" (OP04-017) nunca era parseada — novo
   `conditions['leader_state']` genérico (active/rested).
   `diff_parser.py` MUDOU=1 (só OP04-017).

**Confirmados como JÁ RESOLVIDOS (nota do TODO.md estava desatualizada,
sem código novo necessário):**
- OP15-074 (Varie): foto confirma `DON!! −1` explícito, parser já
  produzia certo.
- OP12-016 (Rayleigh): `target='don_recipient'` já implementado numa
  sessão anterior, nota antiga nunca foi removida.
- OP16-032 (Boa Hancock): `exclude` (`other than [Nome]`) já extraído e
  já respeitado pelo engine.
- OP02-089: `_counter_event_debuff_plan` já retornava plano válido (o
  `count=2` nunca era checado pela função — não havia ambiguidade real
  pro que esse mecanismo precisa saber).

Validação de cada fix: `diff_parser.py` PERDEU=0 em todos, `smoke_fast.py`/
`smoke_test.py` com testes novos de execução real, `smoke_test_broad.py`
(7/7 sem exceção) em cada fix que tocou código compartilhado. Todos os
`parser_audits/*.json` e as notas de TODO.md atualizadas por item.

## 2026-07-19 (282) - Claude - ST30-001/002/017 + ST10-003 — VARREDURA COMPLETA ENCERRADA (100 suspeitos)

Usuário pediu explicitamente para revisar **todos** os 103 suspeitos
restantes até o fim do dia. Fiz a revisão manual carta-a-carta de cada
um; ~98 confirmados falso-positivo já catalogado. 2 candidatos reais
achados, 4 cartas cobertas. Registro completo em
`parser_audits/2026-07-19_encerramento_st30-001_st30-002.json`.

**Fixes:**
1. **ST30-001 Luffy & Ace (líder)** — 2 bugs no mesmo texto: (a) "give
   this Leader -2000 power" ia pro alvo ERRADO (`opp_character`) — a
   checagem de auto-debuff só reconhecia "this Character"/"this card",
   nunca "this Leader" (mesma família estrutural do bug já corrigido em
   OP16-017/lote 9). A condição "if you have a Character with 7000
   BASE power or more" também sumia (mesma assimetria "base" opcional
   já documentada várias vezes). (b) "All of your [Portgas.D.Ace] and
   [Monkey.D.Luffy] cards gain +3000 power" — lista de 2 NOMES nunca
   reconhecida, caía no fallback errado `target=self`. Novo
   `filter_names` em `all_allies` (companheiro do `filter_type` já
   existente nesse target).
2. **ST30-002 + ST30-017** (2 cartas): "reveal up to 1 Character card
   with 6000 power" SEM "or less"/"or more" — custo/power EXATO nunca
   filtrado em `add_to_hand`. Novo `power_eq` propagado (mesmo padrão
   "exato sem qualificador" generalizado várias vezes nesta sessão).

**Extra via generalização**: ST10-003 (mesma forma "give this Leader
-N power", capturada de graça pela mesma correção).

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=4. `smoke_fast.py`
com teste novo cobrindo execução real. `smoke_test.py` TODOS OS TESTES
PASSARAM. `smoke_test_broad.py` 7/7 sem exceção. **Auditor: 103 -> 100
suspeitos.**

**VARREDURA COMPLETA ENCERRADA** conforme pedido do usuário: os 100
suspeitos restantes foram revisados individualmente e confirmados
falso-positivo (sem bug real por trás — "up to 1" = alvo único
implícito, `reveal_deck_top_conditional` sempre revela exatamente 1 por
design, contagens de swap/select já implícitas no nome do target, notas
de errata irrelevantes). **Total da sessão de 19/07: 139 -> 100
suspeitos ao longo de 5 lotes.** Ver blocos 278-282 pro detalhe completo
de cada lote.

## 2026-07-19 (281) - Claude - cauda final da varredura (OP06-057 a OP15-119), 8 cartas — sessão fecha em 103 suspeitos

Última janela pendente do audit (itens 101-109, após zerar 1-100 nos 2
lotes anteriores da sessão). 5 itens aprovados, 8 cartas cobertas.
Registro completo em
`parser_audits/2026-07-19_ultimos_5_op06-057_a_op15-119.json`.

**Fixes:**
1. **OP06-057 + ST12-010 + ST12-013 + ST12-017** (4 cartas):
   `play_from_deck` nunca extraía `cost_eq` quando o texto diz "a cost
   of N" SEM "or less"/"or more" — sempre virava `cost_lte=99` (aceitava
   qualquer custo). O engine já suportava `cost_eq` nesse action, só
   faltava o parser produzi-lo (mesmo suporte que `play_card` já tinha).
2. **ST13-005**: `gain_life` com fonte ERRADA (`deck_top` em vez de
   `hand`) e sem nenhum filtro — o verbo real é "reveal", não
   "add"/"put" (a regra geral só busca a partir de "add"/"put", perdendo
   o "from your hand" que vem ANTES). Novo bloco dedicado, com guard
   pra não duplicar com a regra genérica.
3. **ST14-006**: condição composta "6 ou menos na mão E Character
   custo≥8" — só a 1ª metade sobrevivia.
4. **ST15-003**: "[Opponent's Turn] When this Character is K.O.'d by an
   effect, ..." em PROSA (sem a tag formal "[On K.O.]") — disparava em
   QUALQUER turno do oponente, nunca checando se a carta de fato foi
   K.O.'d. Generalização da mesma lógica já usada pra colisão de tags
   formais "[Opponent's Turn][On K.O.]", agora cobrindo a variante sem
   tag.
5. **OP15-119**: mecânica NOVA `life_top_revealed_cost` (fonte de
   `buff_power_per_count`, escala pelo custo da carta revelada da Life
   via PEEK) — virava um +1000 estático sem escala nenhuma. Achado
   colateral: "opponent activates an Event or [Blocker]" (filler entre
   verbo e tag) não era tolerado pelo guard de keyword nativa — a carta
   ganhava `keyword_blocker` por engano (ela REAGE ao Blocker do
   oponente, não TEM Blocker).

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=8 (exatas as 8
cartas-alvo). `smoke_fast.py` com teste novo cobrindo execução real.
`smoke_test.py` TODOS OS TESTES PASSARAM. `smoke_test_broad.py` 7/7 sem
exceção. **Auditor: 109 -> 103 suspeitos.**

**Fecha a sessão de varredura de 19/07**: as janelas 1-109 do
`audit_parser_coverage.py --min-severity 1` foram totalmente revisadas
ao longo de 4 lotes grandes nesta sessão — **139 -> 103 suspeitos**
(36 suspeitos resolvidos, várias dezenas de cartas extras corrigidas
por generalização em cada lote). Ver blocos 278-281 pro detalhe
completo de cada lote.

## 2026-07-19 (280) - Claude - lote de 16 itens (OP09-051 a OP15-059), ~38 cartas via generalizacao

Janela 51-100 pós-127, taxa de acerto bem mais alta que a janela anterior.
Registro completo em `parser_audits/2026-07-19_lote_16_op09-051_a_op15-059.json`.

**Fixes principais:**
1. **OP09-051 Buggy**: auto-bounce condicional NEGADA ("se você NÃO tem 5
   Characters custo≥5, manda esta carta pro fundo do próprio deck")
   inteira ausente. Nova condição `no_own_chars_cost_gte_count` (só
   field_chars próprios) + `target='self'` novo em
   `place_own_character_bottom_deck`.
2. **OP09-106 Nico Olvia**: "Up to 1 of your [Nico Robin] Leader gains
   +3000 power" — forma TAUTOLÓGICA (só há 1 Leader), virava self-buff
   em vez de `target='leader'` + condição `leader_is`.
3. **OP11-117 (Stage) + OP14-046 + OP11-039 (extra)**: `m_select_buff`
   só capturava o 1º tipo de um OR de 2+ tipos — generalizado pra N
   tipos. Efeito colateral bom: expôs e corrigiu uma 2ª bug no MESMO
   mecanismo (`duration` hardcoded em `'this_turn'` mesmo dentro de
   `[Counter]`, onde deveria ser `'battle_only'` — 9 cartas extras
   corrigidas: EB03-029, EB04-020, EB04-029, OP13-001, OP14-117,
   OP15-038/074/075/076, ST05-017).
4. **OP12-063**: buff duplo estático "+2000 power and +5 cost" — só o
   power era capturado.
5. **OP12-096**: bug ESTRUTURAL — condição travava o K.O. inteiro em
   vez de só fazer upgrade do teto de custo baseline (4→6). Vira 2
   steps mutuamente exclusivos (nova condição `no_char_cost_gte`
   negada / `other_char_cost_gte` já existente).
6. **OP12-116**: 2 bugs de ordem invertida da MESMA família do lote
   anterior (OP15-101) — "a total of up to N" e "{Tipo} type... or
   [Nome]".
7. **OP13-006 + OP13-021 + ST29-012 + P-096**: filtro de NOME no
   destinatário do `give_don` ausente + janela de captura cortava no
   meio de nomes com ponto ("[Monkey.D.Luffy]") — mesma classe de bug
   já documentada em `parse_play_generic`.
8. **OP13-007**: custo composto só metade capturado — novo cost
   `give_don_own` (sem filtro de nome, distinto de `give_don_to_named`).
9. **OP13-024**: aspas duplas no OR de `reveal_from_hand` não
   toleradas (só chaves/colchetes).
10. **OP13-046 Vista**: `substitute_removal` (mecanismo maduro) nunca
    disparava — keyword reminder `[Double Attack]` sem parênteses
    explicativo deixava a cláusula órfã. **Tentativa inicial de
    alargar o regex geral de keyword-reminder foi REVERTIDA** — causava
    duplicação em ~25 cartas não relacionadas (keyword em prosa, não
    tag solta). Fix final: só ampliou a rede de segurança já existente
    ("would leave the field" → também "would be removed from the
    field").
11. **OP13-119**: mecânica NOVA `opp_play_card` — força o OPONENTE a
    jogar da PRÓPRIA mão dele (nunca visto antes; distinto de
    `play_card`, que sempre joga da mão/trash de quem executa).
12. **OP14-001**: `swap_base_power` mesmo bug do item 3 (mesmo
    mecanismo `m_select_buff`), corrigido junto.
13. **OP14-003**: imunidade a K.O. sem filtro de força da FONTE —
    virava blindagem total. Novo `source_power_lte` + `source_card`
    repassado no dispatch principal de ko/trash_character.
14. **OP14-018**: condição inteira ausente no Counter (assimetria
    "base" opcional).
15. **EB04-015/019 + OP14-020/029/033/036/037/038** (8 cartas): "you
    may rest N of your cards:" — atalho oficial de custo referindo-se
    a DON!! sem dizer "DON!!", mapeado pro `rest_don` já existente.
16. **OP14-070**: custo opcional "If you do," (sem ":") — forma não
    coberta pelos ramos existentes de `don_minus`.
17. **OP15-059** (extensão do `unless_opp_pays` criado no bloco
    anterior): mesma gramática de gating, mas custo de prevenção é
    devolver DON ativo em vez de trashar Life.

**Lição arquitetural**: ao encontrar um caminho de parsing "órfão",
preferir ampliar uma rede de segurança ESPECÍFICA e já testada (guardada
contra duplicação) em vez de alargar um regex AMPLO sem contexto
posicional — a 1ª tentativa para OP13-046 causou duplicação em ~25
cartas antes de ser revertida.

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=38 (a tentativa de
fix ampla foi detectada como regressão e revertida ANTES de aceitar).
`smoke_fast.py` com teste novo cobrindo execução real de todos os
mecanismos complexos. `smoke_test.py` TODOS OS TESTES PASSARAM.
`smoke_test_broad.py` 7/7 sem exceção. **Auditor: 127 -> 109
suspeitos.**

## 2026-07-19 (279) - Claude - OP05-099 + OP07-036: 2 mecanicas novas de gating condicional

Janela de 50 suspeitos pós-lote-10 (139→129), taxa de acerto baixa
(2/50 — maioria falso-positivo já conhecido "up to 1" = alvo único
implícito). Registro completo em
`parser_audits/2026-07-19_op05-099_op07-036_custos_condicionais_gating.json`.

**Fixes:**
1. **OP05-099 Amazon**: "Your opponent may trash 1 card from the top of
   their Life cards. If they do not, [debuff]" — a escolha de PREVENIR
   o efeito é do OPONENTE (paga 1 Life pra evitar), oposto do padrão já
   aceito "you may X. If you do, Y" (onde a escolha é do próprio
   jogador ativando, simplificação = aplicar tudo incondicionalmente).
   O parser antigo aplicava o debuff sempre, ignorando por completo a
   prevenção. Novo campo genérico **`unless_opp_pays`** (hoje só
   `type='life_trash'`), resolvido no TOPO de `_execute_step` antes de
   qualquer dispatch por `action` — mesma simplificação já documentada
   em `lock_opp_attack_unless_pays` ("paga sempre que pode").
2. **OP07-036**: "Then, you may rest 1 of your Characters with a cost
   of 3 or more. If you do, rest up to 1 of your opponent's Characters
   with a cost of 5 or less." Um fix anterior (lote 6) já tinha
   corrigido o NÚMERO errado (`cost_lte` pegava 3 em vez de 5) mas
   nunca modelou o CUSTO condicional em si — o `rest_opp_character`
   rodava de graça. Novo campo genérico **`requires_own_cost`** (hoje
   só `type='rest_own_character'` com `cost_gte`/`cost_lte`), anexado
   via POST-PROCESSING em `parse_block` (não early-return, porque a
   cláusula gated é só uma FRAÇÃO do bloco — a 1ª cláusula, +3000
   power, é incondicional e independente).

Ambos os campos são genéricos o bastante pra qualquer mecânica futura
com a mesma forma (oponente decide prevenir / próprio jogador paga
custo condicional pra um step específico), sem acoplamento a
`debuff_power`/`rest_opp_character` especificamente.

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=2 (exatamente as 2
cartas-alvo). `smoke_fast.py` com teste novo cobrindo execução real dos
2 lados de cada gating; 1 teste pré-existente (OP07-036, do lote 6)
atualizado pra incluir o `requires_own_cost`. `smoke_test.py` TODOS OS
TESTES PASSARAM. `smoke_test_broad.py` 7/7 sem exceção. **Auditor: 129
-> 127 suspeitos.**

## 2026-07-19 (278) - Claude - lote de 11 bugs reais (OP14-054 a ST07-017), 46 cartas via generalizacao

Lote de 11 suspeitos severidade-1 aprovados de uma vez (janela 151-200+
do audit). Registro completo em
`parser_audits/2026-07-19_lote_10_op14-054_a_st07-017.json`.

**Fixes principais:**
1. **OP14-054 Fisher Tiger**: mecanica nova `trash_to_hand_count` (irma
   de `draw_to_hand_count`) — "Trash cards from your hand until you have
   N cards in your hand" tinha a clausula INTEIRA ausente.
2. **OP14-091 Mr.2.Bon.Kurei (Bentham)**: `excl_m`/`excl_m_probe` não
   toleravam PARENTESES no nome ("Mr.2.Bon.Kurei.(Bentham)") — a
   auto-exclusão da carta ("other than [Nome]") sumia silenciosamente.
3. **OP14-105 Gorgon Sisters**: custo "reveal N {Tipo1} or {Tipo2} type
   cards" — OR de 2 tipos BRACEADOS nunca reconhecido. Novo regex
   produz `filter_type` como LISTA, reaproveitando o suporte a lista já
   existente do lado consumidor (`reveal_from_hand`).
4. **OP16-039 Gum-Gum Twin Jet Pistol**: ação nova `rest_opp_leader` —
   "[Trigger] Rest your opponent's Leader" (alvo é o Leader, não
   Characters) nunca reconhecida.
5. **OP16-076 The Three Admirals!!**: condição de EXISTÊNCIA PURA "if
   you have an {Admiral} type Character" (sem "or more") ausente. Nova
   condição `chars_gte=1` com negative lookahead `(?! with)` pra não
   conflitar com `other_char_power_gte`/`cost_gte` já existentes.
   Generalização de alto impacto: capturou 5 cartas extras (OP05-096,
   OP06-113, OP08-021, OP10-053, OP13-009).
6. **OP16-077 "Buddha" Sengoku**: 2a cláusula independente "Then, trash
   1 card from your hand" sumia quando `trigger_name='main'`. O
   mecanismo GENÉRICO já existente (whitelist de trigger_name pra
   trash_from_hand-como-efeito) só cobria 'on_play'/'when_attacking'/
   'end_of_turn'/'activate_main'/'counter'/'trigger', faltava 'main'.
   **Tentativa inicial de resolver com um check LOCAL dentro de
   `parse_look_at` causou DUPLICAÇÃO de `trash_from_hand` em OP16-067
   Tsuru** (mesmo texto, mas trigger_name='on_play', já coberto pelo
   mecanismo genérico) — revertido o patch local em favor de só
   estender a whitelist genérica (adicionar 'main'). Achado extra pela
   mesma whitelist: OP15-116.
7. **P-011 Uta**: dígito circulado Unicode (①) como atalho de custo DON
   — normalização nova no topo de `parse_costs`.
8. **P-027 General Franky**: buff `all_allies` ainda não suportava
   filtro `power_lte` ("with 3000 base power or less").
9. **P-059 The World's Continuation**: custo NOVO
   `bounce_any_own_character` (quantidade VARIÁVEL) + step
   `buff_power_per_count(source='bounced_own_this_effect')`. Novo
   atributo dedicado `_last_cost_bounce_any_count` (mesmo padrão de
   `_last_cost_trash_any_count` — não pode reusar `_last_moved_count`,
   resetado entre custo e steps).
10. **PRB02-017 Boa Hancock**: TYPO "K.O up to" (faltando o ponto final
    do VERBO, classe diferente do "K.O'd" do lote anterior que faltava
    o ponto do PARTICÍPIO) bloqueava `parse_ko` inteiro. Corrigido em 3
    pontos (regex principal + 2 ocorrências hardcoded do verbo
    derivado).
11. **ST07-017 Queen Mama Chanter**: `cost_eq` ausente em
    `character_to_owner_life` (só existia `cost_lte`) + custo composto
    "... and add 1 card ... to your hand" só capturava metade (regex de
    `life_to_hand` só reconhecia "you may add", não "... and add"
    encadeado) — mesma família capturou 3 extras (OP15-100, PRB02-016,
    ST07-009).

**Extras via diff_parser.py** (35 no total): ~25 cartas ganharam
`filter_type` correto em `look_top_deck` via o fix retido do lote
anterior ({Tipo} bracket) — auditoria deste lote confirmou o alcance
real (EB03-048, EB04-002, EB04-037, OP08-080, OP10-004, OP14-013,
OP14-019, OP14-067, OP14-097, OP14-100, OP14-113, OP15-026, OP15-037,
OP15-040, OP15-044, OP15-053, OP15-108, OP16-026, OP16-034, OP16-064,
OP16-072, OP16-078, OP16-082, OP16-091, ST29-004); + 5 da família
chars_gte existência pura; + 3 da família life_to_hand composto; +
OP15-116 da whitelist ampliada.

**Lição arquitetural registrada**: mecanismo genérico já existente deve
ser ESTENDIDO em vez de duplicado com um check local dentro de uma
função de parser mais específica — duplicar produz colisão silenciosa
quando ambos os caminhos cobrem o mesmo texto (achado ao investigar a
duplicação de OP16-067 durante a validação deste próprio lote, antes de
aceitar o resultado).

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=46 (11 alvo + 35
extras, cada um verificado manualmente, incluindo a detecção e correção
da duplicação de OP16-067 ANTES de aceitar). `smoke_fast.py` com teste
novo (`test_lote_10_op14_054_a_st07_017`) cobrindo execução real dos
mecanismos mais complexos; 1 teste pré-existente (OP14-091) atualizado
porque validava o comportamento ANTIGO (bugado). `smoke_test.py` TODOS
OS TESTES PASSARAM. `smoke_test_broad.py` 7/7 sem exceção. **Auditor:
139 -> 129 suspeitos.**

## 2026-07-19 (277) - Claude - lote de 15 bugs reais (OP15-020 a OP16-038), 2 mecanicas novas

Lote grande (janela 101-150, ~10-12% de taxa de acerto — a mais
produtiva ate agora). Registro completo em
`parser_audits/2026-07-19_lote_9_op15-020_a_op16-038.json`.

**Falso-positivo confirmado:** OP15-020 — "you may trash 2 cards. If you
do, K.O." ja segue a mesma simplificacao aceita em OP05-038 (aplica
incondicional).

**Fixes principais:**
1. **OP15-022**: condicao "if your deck has 0 cards" (fraseado
   alternativo de `deck_lte`) ausente antes de um `set_active`.
2. **OP15-064 Kotori + OP15-072 Hotori**: condicao composta "[Nome1] and
   [Nome2]" (presenca de 2 characters nomeados) ausente. Nova condicao
   `has_named_characters` (lista, todos exigidos). Kotori tambem ganhou
   `power_lte=5000` (assimetria: `power_lte` ja tolerava "base power or
   less", `power_gte`/`power_lte` de outra familia nao toleravam "power
   or less" sem "base" — corrigido em 3 pontos: rest_opp_character,
   grant_ko_immunity power_gte, substitute power_gte).
3. **OP15-070 Fuza + OP15-071 Holly** (mecanica NOVA): concessao em
   massa de keyword (Unblockable/Double Attack) a um grupo NOMEADO + a
   propria carta (nova acao `grant_unblockable_aura_named`/
   `grant_double_attack_aura_named`) + "[Opponent's Turn] ... base power
   become N" (sujeito composto, verbo PLURAL quebrava o gate). Novo
   `Card.base_power_override_opp_turn`, lido em
   `effective_card_power(your_turn=False)` — reaproveita o parametro
   `your_turn` que os call-sites de combate ja passam, sem precisar
   rastrear turno do zero.
4. **OP15-077 Lightning Dragon**: ação ERRADA (`lock_opp_don` em vez de
   `lock_opp_character_refresh`) porque o filtro de POWER não era
   tolerado pelo regex principal, texto sobrando quebrava o match
   inteiro e caia no fallback generico.
5. **OP15-078 Mamaragan**: mesma assimetria do item 2 (power_lte sem
   "base").
6. **OP15-093**: SELECAO por NOME pra `[Rush: Character]` (mecanismo ja
   existia so pra filtro de TIPO) + concessao de ATRIBUTO adicional
   temporario (novo `Card.extra_attribute_this_turn`, somado no
   matching de `filter_attribute` de substituicao).
7. **OP15-098**: `power_gte=6000` ausente numa substituicao (mesma
   assimetria "base").
8. **OP15-101 Kalgara + OP09-034**: contagem errada (regex "up to a
   total of N" não tolerava as 2 frases juntas) + filtro OR nome/tipo
   misto ("[Nome] or {Tipo} type cards") nunca suportado — novo OR real
   entre `filter_type`/`filter_names` em `add_to_hand` (antes so AND).
9. **OP16-009/014/015 + PRB02-003/ST30-006/ST30-008**: custo
   `trash_from_hand` com filtro de power sem tipo ("with N power from
   your hand") nunca extraido.
10. **OP16-012**: condicao "and have N DON!! cards" (elipse de "you")
    ausente.
11. **OP16-017 + P-092**: ALVO ERRADO — **bug estrutural real**: o ramo
    `is_debuff` de `parse_power_buff` nunca checava self-adjacency antes
    de assumir "debuff = sempre oponente" (so existia pra escolher QUAL
    alvo do oponente). Corrigido na ORIGEM — ja capturou P-092 de graca
    via generalizacao. OP16-017 tambem ganhou condicao negada
    `no_char_type_cost_gte` (tipo+custo, familia de `no_char_power_gte`).
12. **OP16-020**: custo COMPOSTO so metade capturado ("and reveal..."
    encadeado, nao "you may reveal" isolado).
13. **OP16-033 Morley**: `substitute_ko` inteiro ausente por TYPO no
    texto da carta ("K.O'd" faltando o 2o ponto) — tolerancia adicionada
    em 4 pontos que exigiam os 2 pontos literalmente.
14. **OP16-038**: condicao "N [Tipo] type Characters with different card
    names" (NOMES UNICOS, não cartas totais) ausente.

**Extras via diff_parser.py:** OP08-006 (mesma familia do item 2,
variante "in your trash" — nova condicao `has_named_characters_in_trash`),
ST30-016 (mesma familia, mas exige power EXATO nos nomeados — nova
`has_named_characters_power_eq`), EB03-001/OP03-058/OP06-020 (custo
"rest this Leader" — "leader" adicionado ao alternation card/character/
stage).

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=26 (15 alvo + 11
extras, cada um verificado manualmente). `smoke_fast.py` com teste novo
(`test_lote_9_op15_020_a_op16_038`) cobrindo execucao real dos
mecanismos mais complexos. `smoke_test.py` TODOS OS TESTES PASSARAM.
`smoke_test_broad.py` 7/7 sem excecao. **Auditor: 161 -> 139 suspeitos.**

## 2026-07-19 (276) - Claude - lote de 8 bugs reais (OP09-051 a OP10-080)

Continuacao do novo ritmo (lotes de 50 suspeitos). Registro completo em
`parser_audits/2026-07-19_lote_8_op09-051_a_op10-080.json`.

1. **OP09-068/070/073 + familia OP09-065/076/119** (achada via
   `diff_parser.py`): "You may return 1 or more DON!! cards from your
   field to your DON!! deck:" -- custo VARIAVEL (minimo 1, sem
   qualificador "active") inteiro ausente em 6 cartas, habilidades
   pagas viravam GRATIS. `don_minus` reaproveitado, sempre paga o
   minimo (nenhum efeito da familia escala pela quantidade devolvida).
2. **OP09-092 Marshall.D.Teach**: condicao "mao pelo menos 3 menor que
   a do oponente" inteira ausente. Nova condicao
   `hand_fewer_than_opp_by_gte`, espelhando `don_fewer_than_opp_by_gte`
   ja existente.
3. **OP09-105 Sanji + familia OP06-115**: "Then, trash N cards from
   your hand" em bloco `[Trigger]` sumia -- whitelist de
   trash-from-hand-como-efeito ampliada com "trigger" (so cobria
   on_play/when_attacking/end_of_turn/activate_main/counter).
4. **OP10-033 Nami (070) + familia P-078/P-079**: condicao "2+ rested
   'ODYSSEY' type Characters" ausente -- `chars_rested_gte` ganhou
   filtro de TIPO opcional.
5. **OP10-043 Moocy + familia OP10-044/048/056/081/095**: custo "rest 1
   of your 'Dressrosa' type Leader or Stage cards" inteiro ausente
   (nenhuma variante cobria Leader-OU-Stage isolado, so o composto
   "rest this card AND tipo") E o [Banish] ia pra propria Moocy em vez
   do Luffy selecionado. Novo cost `rest_own_leader_or_stage` + nova
   acao `select_grant_banish` (selecao por nome) + novo
   `Card.banish_this_turn`.
6. **OP10-070 Trebol**: mesma familia de OP06-096 (`grant_ko_immunity_type`),
   mas filtro de POWER (nao custo) nunca suportado -- protegia so a
   propria Trebol via fallback generico. `grant_ko_immunity_type` ganhou
   `power_lte`.
7. **OP10-080**: condicao composta "7+ DON e 5 ou menos na mao" -- a
   metade da mao sumia (eliptica, sem repetir "you have").

**Achado colateral durante a implementacao do item 5** (generalizacao
"rest this Leader", ao lado de card/character/stage): 4 cartas extras
(EB03-001, OP03-058, OP06-020, OP15-039) tinham o custo de restar o
proprio LIDER inteiramente ausente.

**Armadilha pega ANTES do commit**: a tolerancia "and" adicionada ao
custo `return_own_character_to_hand` (pra capturar OP10-056) duplicava
o MESMO custo em ST22-005 (ja coberto por um mecanismo composto
dedicado e mais especifico) -- corrigido com guard checando "of your
don!!" nos 40 chars anteriores ao match, confirmado sem duplicacao via
`diff_parser.py` antes de fechar o lote.

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=24 (8 alvo/grupos +
13 capturas corretas adicionais, verificadas uma a uma). `smoke_fast.py`
com teste novo (`test_lote_8_op09_051_a_op10_080`) cobrindo execucao
real de todos os mecanismos. `smoke_test.py` TODOS OS TESTES PASSARAM.
`smoke_test_broad.py` 7/7 sem excecao. **Auditor: 172 -> 161 suspeitos.**

## 2026-07-19 (275) - Claude - lote de 6 bugs reais (OP08-029 a OP08-096) + mudanca de ritmo na varredura

Usuario pediu pra acelerar a varredura (3 dias na mesma tarefa). Mudanca
de processo a partir deste bloco: revisar 50 suspeitos de uma vez (em
vez de 10-25), pre-filtrar os falsos-positivos ja conhecidos e so trazer
pro usuario os candidatos a bug real, num lote maior por rodada de
aprovacao. Registro completo em
`parser_audits/2026-07-19_lote_7_op08-029_a_op08-096.json`.

1. **OP08-029 Pekoms**: "your {Minks} type Characters cost<=3 other than
   [Pekoms] cannot be K.O.'d by effects" -- parseado como auto-imunidade
   GENERICA sem NENHUM filtro (protegia qualquer carta), quando e uma
   AURA concedida a OUTRAS cartas do campo (tipo+custo+exclusao por
   nome, condicionada a Pekoms estar ativa). `is_immune()` so olhava os
   proprios efeitos da carta candidata, nunca escaneava o campo por uma
   aura de outra carta -- mecanismo inteiro ausente. Nova acao
   `grant_ko_immunity_aura`, novo loop em `is_immune()`.
2. **OP08-038**: bloco Main inteiro sumia -- custo "rest N of your
   Characters:" sem filtro nenhum nunca era reconhecido, e "None of your
   Characters can be K.O.'d..." sem tipo entre aspas tambem nunca batia.
   **Achado colateral real de engine**: o pool de `grant_ko_immunity_type`
   incluia o Leader sempre que `cost_lte` fosse `None` -- nunca
   exercitado antes (Nico Robin/OP06-096 sempre tinham filter_type OU
   cost_lte), mas errado pra qualquer chamada sem filtro nenhum. Pool
   corrigido pra sempre `field_chars` (Leader nunca entra nesta acao).
3. **OP08-049**: clausula de posicionamento INLINE ("and place it at the
   top or bottom of your deck") vinha ANTES do "If" (nao depois, como o
   padrao ja tratado), quebrando a ancora do regex e derrubando a
   condicao inteira -- Rush disparava sempre. Novo valor
   `return_to='top_or_bottom'` (heuristica: mantem no topo se bateu,
   manda pro fundo se nao bateu).
4. **OP08-052 + OP08-054**: "type including 'X' AND a cost of N or
   less" -- cost_lte caia no fallback 99 porque so "WITH a cost of" era
   tolerado (mesma classe de bug ja corrigida alhures na mesma funcao,
   so nao propagada aqui).
5. **OP08-058**: custo "turn 2 cards from the top of your Life cards
   face-up" inteiro ausente -- regex so tolerava o literal "1 card"
   singular. Generalizado pra N>1, parser + engine (handler virava so
   `me.life[-1]` fixo, agora vira as ultimas N cartas).
6. **OP08-096**: mecanica nova -- mill onde o efeito seguinte e
   condicionado ao CUSTO da carta MILHADA (nao revelada). Nova acao
   `trash_deck_top_conditional`, espelhando `reveal_deck_top_conditional`
   mas pro mill (a carta ja sai do deck e vai pro trash, nao fica
   revelada -- mill seco, sem trigger, regra do projeto).

**2 capturas extras da mesma generalizacao** (achadas so no
`diff_parser.py`, nao na lista original apresentada ao usuario):
OP01-055 ("You may rest 2 of your Characters: Draw 2 cards" -- custo
inteiro sumia, draw 2 era GRATIS) e OP04-083 Sabo (mesmo gap do item 2,
"None of your Characters can be K.O.'d" sem tipo).

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=9 (7 alvo + 2 extras).
`smoke_fast.py` com teste novo (`test_lote_7_op08_029_a_op08_096`)
cobrindo execucao real de todos os 6 mecanismos. `smoke_test.py` TODOS
OS TESTES PASSARAM. `smoke_test_broad.py` 7/7 sem excecao. **Auditor:
178 -> 172 suspeitos.**

## 2026-07-19 (274) - Claude - lote de 6 bugs reais (OP07-009 a OP07-097)

Continuacao da varredura. Usuario aprovou implementar os 6 de uma vez.
Registro completo em
`parser_audits/2026-07-19_lote_6_op07-009_a_op07-097.json`.

1. **OP07-009**: `select_grant_double_attack` nao suportava filtro de
   COR ("up to 1 of your RED Characters... gain [Double Attack]") --
   novo grupo de captura opcional pra cor no regex existente.
2. **OP07-036**: bug de NUMERO TROCADO -- `cost_lte = re.search('cost of
   (\d+) or', t)` buscava no TEXTO INTEIRO e pegava o "3" de uma clausula
   de custo opcional bem anterior em vez do "5" da propria clausula do
   step. Corrigido reaproveitando o capture group ja existente do match
   principal (sem re-busca desescopada).
3. **OP07-050 + OP07-052**: condicao "N or more [Tipo A] OR [Tipo B]
   type Characters" -- OR multi-tipo nunca era suportado em
   `chars_gte_type_filter` (so 1 tipo). Agora aceita lista, engine ja
   suportava via `any()`.
4. **OP07-059**: "Select your opponent's rested Leader and up to 1
   Character card. The selected cards will not become active" -- trava
   MISTA Leader+Character inteira ausente. Nova acao
   `lock_opp_leader_and_character_refresh`. **Achado colateral real:**
   `refresh_phase` nunca checava `p.leader.frozen_next_refresh` (so
   `field_chars`) -- travas de refresh mirando o LIDER eram
   silenciosamente no-op no engine, mesmo que o parser algum dia gerasse
   o step certo. Corrigido pra espelhar a logica ja usada em
   `field_chars`.
5. **OP07-094 + irma OP07-055**: clausula de auto-bounce CONDICIONAL
   ("Then, if trash>=10, return up to 1 of your Characters with a type
   including 'CP' to the owner's hand") e o bloco `[Trigger]` inteiro
   ("Return up to 1 of your Characters to the owner's hand") sumiam por
   completo -- `parse_bounce` so reconhecia filtro de tipo ANTES de
   "Characters" (`[Tipo] type Characters`), nunca DEPOIS ("with a type
   including 'X'"), e nunca um auto-bounce totalmente sem filtro. OP07-055
   tem o mesmo gap (2a sentenca do Counter, sem condicional) mas nunca
   foi flagrado pelo audit porque o "1" que faltava ja aparecia em outro
   lugar do JSON (custo do trigger) -- mascarado pela heuristica de
   "numero presente em algum lugar". `split_then_if` (existente) ja fazia
   o scoping por-step da condicao corretamente; so faltava `parse_bounce`
   reconhecer as 2 clausulas novas.
6. **OP07-097**: "Select up to 1 [Egghead] type card with a cost of 5 or
   less from your hand and play it OR add it to the top of your Life
   cards face-up" -- mecanica de ESCOLHA (jogar OU vida) inteira
   ausente; o parser generico de `gain_life` capturava so a clausula
   isolada "add it to the top of your life cards" (sem "from your hand"
   adjacente -- essa parte pertence a clausula anterior), source virava
   o fallback `deck_top` (errado, a carta nunca sai do deck), e a
   alternativa de jogar + filtro de tipo/custo sumiam inteiras. Novo
   bloco especial em `parse_block` (mesma familia estrutural do
   `queen_m`/OP04-040) produzindo `_choice` com 2 ramos.

**Known follow-up fora de escopo:** OP07-036 tem um custo opcional
inteiro ("you may rest 1 of your Characters with a cost of 3 or more. If
you do, ...") que continua ausente do parse -- o bug reportado era so o
numero trocado, nao esse custo em si. Nao corrigido agora; registrar
como suspeito separado se reaparecer em varredura futura.

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=8 (6 alvo + 2 capturas
corretas adicionais: OP07-052, OP07-055). `smoke_fast.py` com teste novo
(`test_lote_6_op07_009_a_op07_097`) cobrindo execucao real do OR
multi-tipo, do scoping por-step do "Then, if" (buff incondicional +
bounce condicional) e da trava mista Leader+Character via
`refresh_phase` real. `smoke_test.py` TODOS OS TESTES PASSARAM.
`smoke_test_broad.py` 7/7 sem excecao. **Auditor: 183 -> 178 suspeitos.**

## 2026-07-19 (273) - Claude - lote de 12 bugs reais (OP03-096 a OP06-117)

Continuacao da varredura (itens 33-53, apos o lote do bloco 272). Usuario
aprovou implementar os 12 de uma vez. Registro completo em
`parser_audits/2026-07-19_lote_12_op03-096_a_op06-117.json`.

1. **OP03-096**: K.O. com alvo ALTERNATIVO (Stage) ausente -- novo campo
   `alt_target`/`alt_cost_lte` no step `ko`.
2. **OP04-028 + OP04-034**: condicao "N or more ACTIVE DON!! cards" nunca
   batia (qualificador "active" quebrava o regex de `don_gte`).
3. **OP04-040 Queen**: condicao "total <=4 vida+mao" ausente + "instead of
   drawing" (escolha mutuamente exclusiva) nunca modelada -- as duas
   acoes disparavam JUNTAS. Nova condicao `life_and_hand_total_lte` +
   nova checagem de condicoes POR-OPCAO em `choice_step_viable` (antes so
   checava material disponivel, nunca `conditions`).
4. **OP04-118 Nefeltari Vivi**: "All of your red Characters cost>=3,
   other than this Character, gain [Rush]" -- concessao em MASSA
   (cor+custo, exclui a propria carta) virava um self-buff sem sentido
   via o fallback generico. Nova acao `grant_rush_aura`.
5. **OP05-099 Amazon**: investigado, **NAO e bug** -- "your opponent may
   X. If they do not, Y" ja segue a MESMA simplificacao ja aceita
   (OP05-038: aplica Y incondicional, ignora a escolha do oponente).
   Falso-positivo confirmado, nenhuma mudanca.
6. **OP06-011 + P-060/ST27-001**: custo "rest N of your [Nome] cards:"
   (nome proprio, sem "rest this") inteiro ausente.
7. **OP06-014 + OP03-001/OP15-002/P-051/ST16-002**: "trash any number of
   [filtro]? cards... +N power for every card trashed" -- buff DINAMICO
   virava +1000 fixo SEM NENHUM custo. Novo cost `trash_any_from_hand`
   (quantidade variavel) + novo source `trashed_hand_this_effect` em
   `buff_power_per_count`. **Armadilha real:** `self._last_moved_count`
   (onde eu tentei gravar a contagem primeiro) e resetado pra 0 logo
   apos `_pay_costs()`, ANTES do loop de steps rodar -- corrigido com
   atributo proprio (`_last_cost_trash_any_count`) imune a esse reset.
8. **OP06-063**: filtro de power (<=4000) ausente em `add_from_trash`.
9. **OP06-074**: variante por POWER (nao so custo) do `ko_selected` ja
   existente -- "if that Character has N power or less, K.O. it".
10. **OP06-083 + irma OP14-056**: "This Character's effect is negated
    during this turn" -- a UNICA passiva propria dessas 2 cartas e
    `cannot_attack_self`, entao negar "o efeito desta carta" libera o
    ataque por 1 turno. Novo campo `Card.own_effect_negated_this_turn` +
    nova acao `negate_own_effect`, checado em `is_attack_locked_self`.
    OP14-056 tem gatilho reativo em prosa sem tag formal -- fora de
    escopo (so o step de beneficio foi coberto, fica inerte pra essa
    carta especifica).
11. **OP06-096**: filtro de custo (<=7) ausente numa imunidade de KO em
    massa temporaria -- protegeria QUALQUER character, nao so os
    baratos. `cost_lte` adicionado a `grant_ko_immunity_type` (mesma
    acao do Nico Robin, generalizada).
12. **OP06-117**: 2o componente de um custo composto ("rest this card
    AND 1 of your [Enel] cards") ausente -- so `rest_self` era cobrado.

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=19 (12 alvo + 7
capturas corretas adicionais). `smoke_fast.py` com teste novo
(`test_lote_12_op03_096_a_op06_117`) cobrindo execucao real dos 11
mecanismos implementados. `smoke_test.py` TODOS OS TESTES PASSARAM.
`smoke_test_broad.py` 7/7 sem excecao. **Auditor: 196 -> 183 suspeitos.**

## 2026-07-19 (272) - Claude - lote de 5 bugs reais (OP03-021 a OP03-083)

Continuacao da varredura (itens 21-32, apos o lote do bloco 271). Registro
completo em `parser_audits/2026-07-19_lote_5_op03-021_a_op03-083.json`.

1. **OP03-021 Kuro + familia (OP03-036/037, OP08-037)**: custo "you may
   rest N of your [Tipo] type Characters:" inteiro ausente -- engine ja
   suportava filter_type em `eligible_cards`, so faltava o parser gerar.
2. **OP03-040 Nami (lider)**: regra "when your deck is reduced to 0, you
   win the game instead of losing" inteira ausente -- essa carta usa
   "according to the rules" em vez da frase-preambulo padrao "under the
   rules of this game" que gateia TODO o bloco de `game_rules`, entao
   nunca era nem tentada. Nova rule `deck_out_win_instead_of_loss` +
   `play_turn()` agora inverte o resultado padrao de deck-out pro dono
   dessa carta.
3. **OP03-045/OP03-049/OP03-053**: condicao "if you have 20 or less cards
   in your deck" inteira ausente -- nova condicao `deck_lte` (mesma
   familia de hand_lte/life_lte, mas pro tamanho do proprio deck).
4. **OP03-070 Ace + familia (OP16-083/092)**: custo "trash 1 Character
   card with a cost of N (or more)? from your hand" perdia o filtro de
   custo inteiro (aceitava qualquer carta da mao) -- o regex existente so
   reconhecia filtro por NOME/TIPO entre colchetes, nao um filtro de
   custo puro.
5. **OP03-083 Corgy**: parsing ERRADO por completo -- "look at 5 cards
   ... and trash up to 2 cards. Then, place the rest at the bottom"
   virava um `add_to_hand(count=1)` INVENTADO (a carta nao tem nenhum
   add-to-hand no texto real). Nova acao `trash_from_looked_deck` (mill
   dentro do grupo olhado, mesmo escopo de `add_to_hand` mas remove pro
   trash escolhendo os de menor board_value). `deck_bottom_rest`/
   `trash_rest`/`deck_reorder_rest` (3 pontos que calculam "quantas
   sobraram do grupo olhado") passam a reconhecer essa acao tambem.

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=12 (exatamente as 12
cartas das 5 familias). `smoke_fast.py` com teste novo
(`test_lote_5_op03_021_a_op03_083`) cobrindo execucao real dos 5
mecanismos. `smoke_test.py` TODOS OS TESTES PASSARAM. `smoke_test_broad.py`
7/7 sem excecao. **Auditor: 204 -> 196 suspeitos.**

## 2026-07-19 (271) - Claude - lote de 8 bugs reais (OP02-030 a OP03-012)

Continuacao da varredura apos o fix do audit (bloco 270). Usuario aprovou
implementar os 5 bugs reais achados no lote de 10 itens 11-20 (mostrado
apos os falso-positivos ja confirmados) -- na implementacao, a mesma
gramatica de "trash up to N cards from your hand" apareceu numa 3a carta
(OP09-059) com uma clausula extra (mill ligado ao resultado real do
trash), totalizando 6 fixes/8 cartas-alvo. Registro completo em
`parser_audits/2026-07-19_lote_8_op02-030_a_op03-012.json`:

1. **OP02-030 Kouzuki Oden**: `[On K.O.]` inteiro sumia (janela de 20
   chars em `parse_play_from_deck` cortava "green \"land of wano\" type
   character card" por 1 caractere) + custo exato "with a cost of 3"
   (sem "or less") virava `cost_lte=99`. Janela ampliada pra 40, novo
   `cost_eq` suportado quando nao ha "or less".
2. **OP02-049 Emporio.Ivankov (049)**: condicao "if you have 0 cards in
   your hand" inteira ausente (hand_lte/hand_gte exigem qualificador) --
   o draw disparava sempre. Nova condicao `hand_eq`.
3. **OP02-051/OP02-069**: mecanica "draw cards so that you have N cards
   in your hand" (dinamica) nunca parseada. Nova acao
   `draw_to_hand_count`.
4. **OP02-059/OP02-070/OP09-059**: clausula "Then, trash up to N cards
   from your hand" (2a ocorrencia independente) nunca capturada -- o
   regex so aceitava contagem fixa e so rodava em 3 dos 5 triggers
   relevantes. Expandido pra `activate_main`/`counter` tambem, `re.
   finditer` no lugar de `re.search` (capturar TODAS as ocorrencias, nao
   so a 1a). **Armadilha:** a expansao causou uma regressao real em 7
   cartas (custo composto "trash N from hand AND rest/trash ESTA carta:"
   duplicava como step) -- corrigida com guard "you may" (se aparece nos
   40 chars antes do match, e sempre custo/condicional, nunca este
   efeito). Esse mesmo guard tambem corrigiu OP16-035 (removeu um trash
   forcado incorretamente de um "you may X. If you do, Y" que deveria
   ser condicional).
5. **OP09-059 (clausula extra)**: "Trash the same number... from the top
   of your deck as you did from your hand" -- mill dinamico ligado ao
   resultado real do `trash_from_hand` anterior (mesmo padrao de
   `self._last_moved_count` ja usado por `place_*_bottom_deck`).
6. **OP03-012 Marshall.D.Teach**: custo "trash 1 of your red Characters
   with 4000 power or more" virava `trash_from_hand` (zona ERRADA -- CAMPO,
   nao mao) porque o regex de `trash_own_character` nao tolerava filtro
   de COR. Bug de regex proprio descoberto na implementacao: o espaco da
   alternancia de cores ficava preso so na ULTIMA alternativa por
   precedencia de `|` (`(black|red|...|purple )` so aplicava o espaco a
   "purple"), corrigido agrupando cor+espaco como unidade.

**Achado colateral, fora de escopo (registrado pra batch futuro):**
EB04-011 tem "draw a card for each of your [Tipo] type Characters" (draw
dinamico por CONTAGEM de characters de um tipo -- mecanica nova, maior
que o escopo desta sessao) + uma variante de "trash the same number"
ligada ao DRAW (nao ao trash-from-hand como OP09-059) -- ambas ainda
ausentes do parseado.

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=11 (8 alvo + 3 capturas
corretas adicionais da mesma generalizacao). `smoke_fast.py` com teste
novo (`test_lote_8_op02_030_a_op03_012`) cobrindo execucao real dos 6
mecanismos. `smoke_test.py` TODOS OS TESTES PASSARAM. `smoke_test_broad.py`
7/7 sem excecao. **Auditor: 212 -> 204 suspeitos.**

## 2026-07-19 (270) - Claude - fix no audit_parser_coverage.py: sinal negativo

Ao revisar o lote seguinte de suspeitos (itens 11-20), quase todos eram a
MESMA classe de falso-positivo ja confirmada (`buff_power`/`debuff_power`
com `target` numa categoria singular -- `own_character`, `leader_or_
character`, `opp_character`, `opp_leader_or_character`, `leader` -- onde
"up to 1" ja e alvo unico implicito). Achado a parte: EB04-048 Rob Lucci
apontava "2" ausente, mas o "2" ESTAVA no JSON como `-2` (custo negativo,
"-2 cost for every 5 cards"). Bug no proprio `audit_parser_coverage.py`
(nao no parser/engine): `_numbers_in_text()` extrai magnitude sem sinal
(regex de numero nao inclui '-'), mas `_numbers_in_json()` fazia
`str(int(obj))` preservando o sinal -- "-2" no JSON nunca batia com "2"
do texto, pra QUALQUER valor negativo do banco inteiro. Corrigido
normalizando `_numbers_in_json()` pra `str(abs(int(obj)))` (a auditoria
verifica presenca de MAGNITUDE, nao sinal). Usuario pediu especificamente
esse fix (nao a supressao mais ampla da classe "alvo unico", que fica em
aberto). Suspeitos: 213 -> 212 (so Rob Lucci saiu). `smoke_fast.py` OK
(mudanca so no script de diagnostico, sem tocar parser/engine -- sem
necessidade de smoke_test/broad nem registro em parser_audits).

## 2026-07-19 (269) - Claude - fix generico: "[Your Turn][On Play]" disparava 2x (15 cartas)

Retomada a varredura do parser (213 suspeitos, severidade 1). Lote de 10
mostrado ao usuario: a maioria false-positivos ja conhecidos (`give_don`/
`buff_power`/`debuff_power` com "up to 1" = alvo unico implicito, sem
necessidade de campo extra) + 1 ja reportado antes (OP09-118) + 1
mecanismo ja correto por design (`reveal_deck_top_conditional` sempre
revela exatamente 1 carta, 10 cartas usam sem variante "revele N").

**Achado real, fora do que a carta-gatilho (ST22-011 Whitey Bay) sugeria:**
15 cartas com a tag colada `[Your Turn][On Play]` geravam DOIS blocos
identicos ('on_play' + 'your_turn') no JSON -- o efeito disparava ao
entrar em campo (sem checar de quem e o turno) E reaplicava de novo TODO
turno seguinte via `apply_your_turn_buffs()`. Usuario mostrou uma carta
ainda nao lancada (Killer, ST36-002, chega semana que vem) com o mesmo
padrao + um `[Trigger]` proprio -- isso corrigiu minha primeira tentativa
de fix (colapsar num unico `on_play` gated por turno, sem mais nada):
quebraria o caso real de jogar a carta via Trigger de vida no turno do
OPONENTE (2 cartas ja no banco fazem isso: EB03-058 Vegapunk, OP04-101).

Fix final (ver `parser_audits/2026-07-19_your_turn_on_play_disparo_unico.json`
para o registro completo): parser funde os dois blocos duplicados num
unico `on_play` com `conditions.your_turn_only=True`; engine ganhou
`EffectExecutor.execute(is_my_turn=True)` (mesmo padrao ja usado por
`is_opp_turn`/`opp_turn_only` em on_ko) -- gate so bloqueia se
`your_turn_only` E `not is_my_turn`. Default True cobre a maioria (Main
Phase normal / play_card de outro efeito, sempre no turno de quem
controla); os 2 call-sites que resolvem Trigger de vida (dano de combate
e fora de combate) passam `is_my_turn=False` explicitamente. Propagado
via `self._is_my_turn` ate `_put_into_play` (o play_card aninhado dentro
da resolucao do proprio 'trigger').

**Armadilha durante a implementacao:** a primeira versao do fix (mesclar
logo apos o loop de `trigger_patterns`) quebrou 7 das 15 cartas -- um
fallback DIFERENTE, mais abaixo no arquivo (`your_turn_power`, regex
solto por "+N power" apos "[your turn]"), so escreve `result['your_turn']`
quando a chave esta AUSENTE; como meu merge deletava 'your_turn' cedo
demais, esse fallback via a chave ausente e a recriava com um conteudo
GENERICO e ERRADO (`target=self, duration=your_turn` em vez do buff real
da carta). Corrigido movendo o merge pro FIM da funcao (depois de todos
os fallbacks que tocam 'your_turn'). `diff_parser.py` pegou isso na hora
(MUDOU mostrava conteudo diferente do esperado nessas 7).

Validado: `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=15 (exatamente as 15).
`smoke_fast.py` com teste novo de EXECUCAO real (ST22-011 dispara 1x so;
Vegapunk via Trigger no turno do oponente NAO compra; Vegapunk jogada
normal compra). `smoke_test.py` TODOS OS TESTES PASSARAM. `smoke_test_broad.py`
7/7 sem excecao (mexeu em `EffectExecutor.execute`, codigo compartilhado
por toda a base -- broad rodado na hora, nao esperou 3 fixes).

**213 suspeitos ainda restantes** (este fix nao reduz o contador do
audit -- os "numeros perdidos" continuavam batendo certo antes e depois,
o bug era de EXECUCAO/estrutura, nao de extracao de numero).

## 2026-07-19 (268) - Claude - decisao do usuario: adiar pendencias do proxy

Usuario pediu para registrar e ADIAR as 3 pendencias do bloco 267 (proxy/
telemetria: `state_after_coverage_pct` 88.5% < gate 95%, 3
`semantic_transition_failed`, `winner: null` cosmetico em `logs/index.json`)
ate terminar a varredura do parser em andamento (213 suspeitos restantes
nesta data, `audit_parser_coverage.py --min-severity 1`). Nao retomar
bot/proxy antes disso sem pedido explicito do usuario -- prioridade agora e
fechar os lotes de cartas pendentes. Nenhum codigo alterado nesta sessao,
so documentacao (TODO.md/HANDOFF.md).

## 2026-07-18 (267) - Claude - teste ao vivo do proxy: causa raiz do gap de confirmacao/outcome

Usuario pediu teste ao vivo do proxy/motor apos o merge das 4 tarefas de
background (bloco anterior). Rodada 1 (`Eustass.Captain.Kid-Y_x_Jinbe-G_
2026-07-18T02.08.40`, derrota): `/outcome` nunca foi chamado pelo plugin
apesar do jogo chegar em `GameOver` (confirmado no `LogOutput.log` e no
combat log baixado manualmente em `E:\Games\...\CombatLogs\2026-07-18T02.16.13.log`,
que tem as 3 linhas finais que o AutoSaved corta: `Downloaded the Combat
Log!` + `GameOver`). Auto-coleta nao disparou (usado o fallback manual
`collect_latest_match.py`, log entrou no banco igual). `state_after_
coverage_pct` deu 0% nas 58 decisoes -- nao so o outcome, o loop inteiro
de confirmacao (`/execution`) estava mudo.

**Causa raiz (nao e bug de logica): DLL do plugin desatualizada.**
`BOT/OPTCGBotPlugin.dll` instalado no jogo estava compilado em 14/07
11:39 -- ANTES dos 3 commits de 17/07 a noite que adicionaram toda essa
telemetria (`5229ffb` instrumenta decisoes, `11e6ad4` amplia telemetria,
`ffd6fb1` adiciona deteccao de GameOver/outcome, todos ~23h de 17/07). O
binario rodando na partida simplesmente nao tinha esse codigo ainda --
por isso o heartbeat conseguia mostrar `state=GameOver` (codigo antigo
sem os early-returns novos) mas nunca chamava `/outcome`.

**Fix:** `BOT\setup_bepinex.ps1` (dotnet build + copia pra
`BepInEx\plugins\OPTCGBotPlugin.dll`, jogo fechado). DLL foi de 40960 ->
47616 bytes, timestamp novo (18/07 02:21).

**Validacao (rodada 2, `Krieg-RG_x_Smoker-B_2026-07-18T02.41.46`, derrota
de novo):** `/outcome` chamado, `outcome_coverage_pct` 0% -> 100%,
`execution_success_pct` null -> 98.9% (88/104 confirmadas), auto-coleta
funcionou sozinha (sem fallback manual). Antes de rodar essa 2a partida,
o servidor antigo (processo da rodada 1, ainda de pe segurando a porta
8765) foi encerrado e um novo subido, pra nao misturar sessao/decision
log antigo com o novo teste.

**Pendencias anotadas (nao resolvidas ainda, para retomar amanha):**
- `state_after_coverage_pct` 88.5% -- ainda abaixo do gate de 95% (12 de
  38 decisoes de `target` ficaram `pending`, sem confirmacao).
- `semantic_transition_failed`: 3 casos onde o DTO mudou mas a transicao
  principal esperada da acao nao foi reconhecida (severidade `error` no
  relatorio de eficiencia).
- `logs/index.json`: campo `winner` ficou `null` na entrada nova
  (`Krieg-RG_x_Smoker-B_2026-07-18T02.41.46`) mesmo com `/outcome` tendo
  capturado a derrota certinho na telemetria (`outcomes.losses: 1`) --
  gap cosmetico em `collect_latest_match.py`/`parse_combat_log.py`, nao
  afeta regra de jogo nem os gates.

Ambos os combat logs desta sessao ja estao no banco (raw/parsed/2 decks
cada, `index.json` atualizado): `Eustass.Captain.Kid-Y_x_Jinbe-G_
2026-07-18T02.08.40` e `Krieg-RG_x_Smoker-B_2026-07-18T02.41.46`.

## 2026-07-18 - Merge das 4 tarefas de background (worktrees) na main

Usuario tinha iniciado 4 tarefas de background numa sessao anterior
(worktrees separados) enquanto trabalhava com o Codex em paralelo na
main. Ao retomar, revisado o estado de todos os worktrees antes de
mexer em qualquer coisa:

- `affectionate-aryabhata-a6ef2f` (`b3deb09`): `filter_names` (lista) em
  play_card -- PRB02-018 (OR)/ST13-006 (AND/"each of"). Commit completo.
- `keen-bassi-bafadf` (`f5d58aa`): investigou o pedido original sobre
  `cost_lte` dinamico e achou a causa raiz REAL (vazamento de janela em
  `parse_play_generic`, nao a string sentinela que eu suspeitava) --
  OP07-070/OP08-062 + bonus OP03-027. Commit completo.
- `kind-gates-19e072` (`97a5427`): investigou meu pedido sobre
  `apply_conditional_keyword_passives()`/P-039 e **descartou a premissa**
  (P-039 nunca foi bug -- ja existe `apply_your_turn_buffs()`, mecanismo
  bem mais amplo). Achou e corrigiu o bug REAL: familia OP-03 de mill
  reativo disparando incondicionalmente. Commit completo.
- `quirky-mccarthy-4e4629` (`f4211a2`): Kin'emon (OP10-026/027) + custo
  composto `place_self_bottom_deck`, generalizado pra mais 5 cartas
  self-only descobertas na varredura. Commit completo.
- `practical-payne-07153f`: tentativa INCOMPLETA e nunca commitada do
  mesmo bug de `cost_lte` (helper `resolve_cost_lte_value` pela metade).
  Descartada (worktree removido, branch deletada) por decisao do usuario
  -- o keen-bassi ja resolveu o mesmo problema de forma mais precisa.

Os 4 commits completos foram cherry-picked pra `main` um de cada vez,
com `diff_parser.py`/`smoke_fast.py`/`smoke_test.py`/`smoke_test_broad.py`
completos entre cada merge (nenhuma regressao). Conflitos só em
`HANDOFF.md`/`smoke_fast.py` (insercoes no mesmo ponto do arquivo por
tarefas paralelas, sem sobreposicao real de conteudo) -- resolvidos
concatenando os dois lados. `gerar_effects_db.py`/`decision_engine.py`/
`card_effects_db.json`/`parser_snapshot.json` fizeram merge automatico
limpo em todos os 4 cherry-picks.

Memoria atualizada com a correcao da premissa P-039 (ver
`project_apply_your_turn_buffs_mecanismo_amplo.md` e
`project_parser_audit_progress.md`, ambas em
`C:\Users\arthu\.claude\projects\...\memory\`).

**Estado apos o merge:** suspeitos 213 (audit_parser_coverage.py
--min-severity 1). 4 worktrees + branches removidos. `git status` limpo
(so `.claude/` sem rastreamento, esperado). Commits novos em `main`:
`19e1730`, `5d8b924`, `440eab4`, `112d3a4` (nesta ordem), todos depois
de `0d4bc2c` (topo do trabalho do Codex). Nao empurrado ainda -- aguardando
decisao do usuario sobre o push.

## 2026-07-18 (266) - Codex -> Claude - estado pronto para continuar

Troca solicitada pelo usuario. O lote 2 esta concluido no commit `67ebff9`;
o auditor tem 217 suspeitos restantes e a evidencia detalhada esta em
`scriptis_da_ia/parser_audits/2026-07-18_lote_10_op01-063_a_op05-100.json`.

Claude deve ler este arquivo, `AGENTS.md` e `TODO.md`, conferir `git status`
e selecionar o lote 3 com 10 falhas reais. Antes de editar o parser, mostrar
as 10 cartas/familias ao usuario e aguardar aprovacao explicita. Manter o
workflow snapshot -> fix global -> diff com PERDEU=0 -> gerar DBs -> testes
dirigidos -> smokes -> auditoria JSON -> HANDOFF/TODO -> commit.

Estado de validacao entregue: `smoke_fast.py` OK, `smoke_test.py` OK,
`smoke_test_broad.py` 7/7 sem excecao e auditor 228 -> 217. A pasta
`.claude/` esta sem rastreamento e nao pertence aos commits deste trabalho.

## 2026-07-18 (265) - Codex - lote 2 de 10 pendencias de cartas

Usuario aprovou OP01-063, OP01-098, OP01-105, OP02-002, OP02-015,
OP05-026, OP05-058, OP05-080, OP05-098 e OP05-100.

Parser e motor agora cobrem revelacao persistente da mao adversaria, busca no
deck inteiro, evento ao anexar DON, filtro cor+custo exato, custo de restar
Character por custo minimo, reciclar trash, limpar ambos os campos/maos,
gate de vida zero e substituicao geral de remocao. OP02-016 foi corrigida
pela familia de Makino. Nenhum codigo de carta foi hardcoded no motor.

Auditor: 228 -> 217 suspeitos. Diff antes da regeneracao: GANHOU=3,
PERDEU=0, MUDOU=8 (11 cartas conferidas). Depois: `gerar_dbs.py` (2614),
snapshot e diff 0/0/0. `smoke_fast.py` e `smoke_test.py` passaram; broad
completou 7/7 sem excecao antes do timeout do wrapper. Evidencia:
`scriptis_da_ia/parser_audits/2026-07-18_lote_10_op01-063_a_op05-100.json`.

Proximo passo: selecionar o lote 3 de 10 falhas reais e aguardar aprovacao.

## 2026-07-18 (264) - Codex - lote 1 de 10 pendencias de cartas

Usuario aprovou explicitamente o lote: EB01-011, OP05-056, EB01-029,
EB01-045, EB03-012, OP04-044, OP04-046, OP04-084, OP05-002 e OP05-007.

Corrigidos parser e motor: custo de Character proprio ao fundo do deck,
reveal condicional com bounce proprio, gate por custo exato, escolha DON ou
Character filtrado, bounce duplo, busca de dois nomes, play filtrado do topo,
buff tipo-ou-Trigger e KO por soma de power. As familias tambem corrigiram
OP03-094, OP07-087, OP08-086, OP09-018 e P-065.

Auditor: 241 -> 228 suspeitos. Diff antes da regeneracao: GANHOU=0,
PERDEU=0, MUDOU=15, todas conferidas. Depois: `gerar_dbs.py` (2614),
snapshot e diff 0/0/0. `smoke_fast.py` e `smoke_test.py` passaram; broad
completou 7/7 sem excecao antes de o wrapper encerrar por timeout. Evidencia:
`scriptis_da_ia/parser_audits/2026-07-18_lote_10_eb01-011_a_op05-007.json`.

Proximo passo: montar lote 2 com 10 falhas reais e aguardar aprovacao da lista.

## 2026-07-18 (263) - Gates do proxy, nome canonico e comparacao entre commits

**Entrada para Claude:** `CLAUDE.md` agora aponta obrigatoriamente para este
bloco e para `specs/metrics-protocol.md`, incluindo as invariantes do nome
canonico, `match_id`, camadas separadas e validacao ao vivo pendente.

Fortalecido tudo que era possivel antes da partida ao vivo:

- `collect_latest_match.py` agora so confirma banco apos verificar a entrada no
  `logs/index.json`, raw, parsed, decks e o nome oficial
  `Lider-Cores_x_Lider-Cores_timestamp`; exit code zero nao basta.
- Corrigido bug estrutural: `_live_match_id` era recriado dentro de cada
  `/decide`; agora nasce no mulligan e permanece ate `outcome`, impedindo deltas
  1/3/5 de cruzarem partidas.
- Toda decisao registra `latency_ms`; relatorio calcula media/p95/max, timeout,
  consistencia de commit e cobertura de outcome.
- Alertas estruturados: execucao/estado/outcome abaixo do gate, pending,
  timeout, commits misturados, baixa cobertura contrafactual, p95 alto e
  transicao semantica incoerente.
- Confirmacao semantica Main Phase: play sai da mao, attack resta, attach aumenta
  DON, activate marca uso e end_turn muda turno.
- `compare_bot_reports.py` compara antes/depois, sinaliza regressoes e rejeita
  manifests/seeds incompativeis; nao afirma causalidade sem snapshots/seeds iguais.

Validado sem jogo: py_compile, 10/10 testes, teste sintetico de match_id estavel,
schema/nome canonico e alertas. Pendente ao vivo: confirmar AutoSaved real,
GameOver, semantica dos prompts auxiliares e calibrar gates com 20-50 partidas.

## 2026-07-17 (262) - Telemetria completa de decisao e resultado

**Complemento de automacao:** `collect_latest_match.py` elimina os dois comandos
manuais. No evento `GameOver`, o server seleciona o `.log` AutoSaved mais novo,
espera a escrita estabilizar, chama o parser oficial com `--add-to-db`, gera o
relatorio da sessao e salva recibo em `metrics/live_runs/`. `BOT_AUTO_COLLECT=0`
desliga; o mesmo script funciona como fallback de um comando.

**Confirmacao visual:** `/collection_status` expoe `idle/running/success/failed`;
o plugin consulta durante `GameOver` e exibe `LOG SALVO NO BANCO` em verde ou o
erro em vermelho, alem de registrar o caminho do recibo no `LogOutput.log`.

Ampliado o protocolo `decision_id` da Main Phase para mulligan, defesa
(`blocker/counter/trigger/reaction/optional`) e selecao de alvos. O server grava
estado anterior, alternativas legais, escolha e contexto; o plugin reporta
`sent` e confirma quando observa mudanca real do DTO. `GameOver` gera evento
`outcome` com `win/loss` e estado final.

O relatorio separa execucao por tipo, calcula deltas futuros de vida/mao/campo/DON
apos 1/3/5 decisoes e mede arrependimento somente quando a busca realmente
simulou alternativas. Plano: `metrics/evidence_collection_plan.json` (5 partidas
live pre-flight, 20 indicativas, 50 self-play por matchup).

**Validado:** py_compile, 7/7 testes, smoke_fast e build C# sem erros. Ainda exige
partida real para confirmar os estados/popup de GameOver do OPTCGSim.

## 2026-07-17 (261) - Telemetria pre/pos-acao com decision_id ponta a ponta

Instrumentada a Main Phase ao vivo sem mover logica estrategica para plugin ou
server. Fluxo novo:

1. `/decide` gera `decisionId` unico.
2. `sim_bridge.choose_action(..., trace_out=...)` registra todas as actions
   pontuadas, flags de elegibilidade, valores da busca e escolha final.
3. `server.py` grava evento JSONL `decision` com DTO pre-acao, alternatives,
   escolha, resposta executavel, timeout e commit.
4. Plugin recebe o mesmo ID, chama `BotExecutor`, reporta `sent` ou `failed`.
5. No proximo `PlayerTurn_Action` estavel, `BotDriver` compara o DTO novo com o
   anterior e reporta `confirmed` ou `failed`, sempre com estado posterior.

Arquivos principais: `BOT/engine_server/telemetry.py`, `server.py`,
`sim_bridge.py`, `GameStateDto.cs`, `EngineClient.cs`, `BotDriver.cs`. JSONL em
`BOT/engine_server/logs/decisions/` (efemero, gitignored). `/health` informa o
caminho do arquivo atual. `bot_efficiency_report.py --decision-log <jsonl>`
agrega coverage, confirmadas/falhas/pendentes, execution_success e gap do score
imediato. `state_fidelity` e `decision_quality` continuam `null`: mudanca de DTO
confirma execucao operacional, nao prova semantica perfeita nem otimalidade.

Escopo deliberado desta primeira entrega: decisoes executaveis da Main Phase
(`play`, `attack`, `attach_don`, `activate`, `end_turn`). Defesa, mulligan e
sub-escolhas de alvo ainda usam endpoints separados e devem receber o mesmo
envelope numa rodada posterior; registrado no TODO, nao escondido como pronto.

**Validado:** `py_compile`; 5/5 testes de `test_bot_efficiency_report.py`;
`dotnet build ... -t:Compile --no-restore -c Release` com 0 erros (6 warnings
preexistentes); integracao sintetica server -> JSONL -> report (1 decisao,
1 confirmada); `smoke_fast.py` completo `SMOKE FAST OK`.

**Para validar ao vivo:** recompilar/copiar plugin via `BOT/setup_bepinex.bat`,
reiniciar server, jogar partida, preservar combat log + decisions JSONL e rodar
`bot_efficiency_report.py --decision-log <arquivo>`.

## 2026-07-17 (260) - Protocolo + relatorio reproduzivel de eficiencia do bot

Implementada a primeira camada profissional de medicao solicitada pelo usuario:

- `specs/metrics-protocol.md`: separa estado, decisao, execucao e resultado;
  define cohorts, comparacao pareada, IC95% bootstrap, gates e schema futuro de
  shadow replay com snapshot pre-acao + `decision_id` ponta a ponta.
- `scriptis_da_ia/bot_efficiency_report.py`: le cohorts explicitos de combat logs,
  calcula metricas observaveis + IC95%, incorpora JSONs motor-vs-motor como proxy
  opcional e grava relatorio JSON. Campos impossiveis com a telemetria atual
  (`state_fidelity`, `decision_quality`, `execution_success`) saem `null`, nunca 0.
- `scriptis_da_ia/metrics/bot_efficiency_cohorts.json`: lista canonica das 5
  partidas humanas e 12 partidas do bot usadas no estudo de 12/07.
- `scriptis_da_ia/test_bot_efficiency_report.py`: 3 testes de regressao.

O script reproduziu a baseline anterior: humano 2,031 ataques/turno, 81,538% no
lider, 4,2 dano/jogo e 5,2 counters; bot 0,880, 42,424%, 1,333 e 2,417. Tambem
revelou a qualidade dos dados: snapshots cobrem 52,3% dos turnos do cohort humano
e 0% do cohort antigo do bot. Proxy Teach (50 jogos) permanece separado: 1,41
ataques/turno, 86,7% no lider, 3,94 dano/jogo, winrate 0,88.

**Validado:** `py_compile`; `python -m unittest -v test_bot_efficiency_report.py`
(3/3); execucao real com 5000 amostras bootstrap + proxy, gerando
`metrics/bot_efficiency_report.json`.

**Proximo passo real:** adicionar telemetria JSONL pre-acao no caminho
engine -> bridge -> plugin, com confirmacao do mesmo `decision_id`; sem isso o
relatorio mede comportamento e dados, mas nao arrependimento ou sucesso do clique.

## 2026-07-17 (259) - TODO atualizado: governanca de contexto + baseline de eficiencia do bot

Atualizado `TODO.md`, que ainda apontava para a baseline de 01/07, para o
estado real apos os blocos 257-258: 241 suspeitos e `9b3494a` local ainda
nao enviado. Adicionado plano de organizacao profissional do contexto:
`AGENTS.md` para invariantes obrigatorias, `specs/` para contratos
verificaveis e skills para workflows repetitivos apoiados por scripts.

Formalizada a medicao antes/depois do bot sem fabricar um score unico. Baseline
historica do Imu ao vivo contra referencia humana: ataques/turno 43,3%, foco no
lider 51,2%, dano/partida 31,0% e counters arrancados 46,2%. O motor com estado
completo e apenas proxy: 1,28 ataques/turno (63,1% do humano; +45,5% sobre o bot
antigo) e 91% no lider. O numero final pos-fix permanece pendente de no minimo
5 partidas ao vivo, logs preservados e relatorio reproduzivel.

**Proximo passo recomendado:** criar `specs/metrics-protocol.md` + script de
relatorio antes/depois; depois extrair `optcg-parser-audit` como primeira skill.

## 2026-07-17 (259) - Vazamento de janela de custo em parse_play_generic (sentinela DON!! dinamico) -- OP07-070/OP08-062 + bonus OP03-027

Sessao dedicada, pedido do usuario: auditoria de `don_count_self`/
`don_count_opp` no `card_effects_db.json` achou 6 cartas com o sentinela
dinamico de `cost_lte` (`_resolve_cost_lte`, `decision_engine.py`), mas o
comentario da funcao so documentava 4 usos legitimos (OP13-099, OP08-098,
OP11-022, P-090). As outras 2 eram bugs de parsing: **OP07-070** (Big Bun)
tinha `cost_lte='don_count_self'` quando o texto diz literalmente "with a
cost of 4 or less" (fixo); **OP08-062** (Charlotte Katakuri, ability
trash-self) tinha so `cost_lte='don_count_opp'`, faltando um `cost_gte=3`
composto ("cost of 3 or more that is equal to or less than the number of
DON!! cards on your opponent's field").

**Causa raiz (generica, nao amarrada as 2 cartas):**
`gerar_effects_db.py::parse_play_generic` buscava cost_lte/cost_eq/o
sentinela dinamico dentro de `janela`, uma faixa que comeca no INICIO da
sentenca/clausula (ultimo `:`/`. ` antes do match de "play up to N"), nao
no fim do proprio match. Quando uma clausula ANTERIOR na mesma sentenca
menciona "number of DON!! cards on ... field" (condicao) ou tem seu
proprio filtro de custo (outra acao, ex: `rest_opp_character`), esse
texto vazava pra dentro da janela e era lido como se fosse o cost_lte do
`play_card`. Fix: extracao de cost_lte fixo/cost_eq/cost_gte
(novo)/sentinela dinamico agora usa `cauda = t[m.end():fim_janela]`
(so o que vem DEPOIS do "play up to N [tipo/nome]"), reflentindo a
convencao fixa do template (a clausula de custo da carta jogada sempre
vem depois do tipo/nome). `type_m`/`color_m` continuam usando `janela`
inteira (precisam ver o "play up to N [tipo]" completo).

**Bonus achado pelo `diff_parser.py` (nao fazia parte do pedido original):**
**OP03-027** (Buchi) tinha `cost_lte=2` vazado da clausula "rest up to 1
of your opponent's Characters with a cost of 2 or less" (acao anterior,
`rest_opp_character`) pro `play_card` de "[Buchi] from your hand" -- Buchi
custa 4, entao a habilidade NUNCA conseguia jogar Buchi (bug funcional
real de jogo, nao so cosmetico no JSON: `eligible_cards` filtra
`card.cost > cost_lte`). Corrigido pela mesma mudanca generica.

Busca global confirmou so essas 3 cartas afetadas (EB02-039 tem o mesmo
texto de condicao de DON!! mas o alvo jogado e filtrado por
nome/power-faixa via `parse_play_from_trash`, funcao irma que ja ancora a
busca no proprio "play up to" e nunca sofreu esse vazamento).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=3 (as 3 mudancas
inspecionadas manualmente, todas correcoes). `gerar_dbs.py` +
`snapshot_parser.py` OK. `smoke_test.py`: TODOS OS TESTES PASSARAM.
`smoke_fast.py`: OK. Comentario de `_resolve_cost_lte`
(`decision_engine.py`) atualizado pra 5 cartas legitimas (incluindo
OP08-062) e documentando os 2 falsos-positivos descartados. Registro em
`parser_audits/2026-07-17_op07-070_op08-062_cost_clause_window_leak.json`.

## 2026-07-17 (257-258) - DON!! N (parenteses explicativo) + custo Life area -- 21 cartas

Continuacao da varredura apos o lote de 9 (blocos 248-256). 2 itens
aprovados pelo usuario.

**257 -- DON!! N (parenteses explicativo):** o atalho de custo "DON!! N:"
sem sinal de menos (fallback ja existente, achado 15/07) exigia o numero
IMEDIATAMENTE seguido de ':' -- mas 19 cartas reais no banco tem um
PARENTESE EXPLICATIVO padrao entre o numero e o ':' ("DON!! 1 (You may
return the specified number of DON!! cards from your field to your
DON!! deck.): efeito"), fazendo o custo inteiro ficar ausente (habilidade
tratada como gratis). Generalizado tolerando qualquer parenteses opcional
no meio. Cartas: EB03-036, OP08-057, OP08-060, OP08-061, OP08-064,
OP08-068, OP08-070, OP08-071, OP08-073, OP08-075, OP08-077, OP09-064,
OP09-077, OP09-079, OP10-067, OP10-069, OP11-063, OP14-062, ST18-005.
**Observacao colateral, NAO corrigida (sem impacto de jogo):** o campo
`optional` desse custo (calculado via presenca de "you may" numa janela
de +/-40/60 chars ao redor do match) fica quase sempre True quando esse
parenteses padrao esta perto -- mas confirmado via grep que esse campo
NUNCA e lido em NENHUM lugar do engine (metadado inerte). Nao vale a pena
investigar mais a fundo por ora.

**258 -- OP01-008 (Cavendish)/OP01-013 (Sanji):** custo "you may add 1
card from your Life area to your hand: efeito" -- variante de redacao
sem posicao explicita (distinta de "from the top/bottom of your Life
cards" ja coberta), custo inteiro ausente. Usa o default ja existente do
executor (source='life_top'), zero mudanca de engine.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=21.
`gerar_dbs.py` + `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste
dirigido novo com EXECUCAO REAL cobrindo os 2 itens. `smoke_test.py`:
TODOS OS TESTES PASSARAM. `smoke_test_broad.py`: 7/7. Registro em
`parser_audits/2026-07-17_don_n_parenteses_e_life_area_cost.json`.

Suspeitos: 247 -> 241.

## 2026-07-17 (257) - filter_names (lista) em play_card: PRB02-018 (OR) e ST13-006 (AND/"each of")

Pedido pontual do usuario: `parse_play_generic`/`filter_name` so suportava 1
nome proprio de filtro. PRB02-018 ("play up to 1 [Sabo], [Portgas.D.Ace],
or [Monkey.D.Luffy] with a cost of 2 from your hand or trash") e ST13-006
("Play up to 1 each of [Sabo], [Portgas.D.Ace], and [Monkey.D.Luffy] with a
cost of 2 from your hand") so capturavam `filter_name='sabo'`, perdendo os
outros 2 nomes inteiramente. Semantica DIFERENTE apesar da forma parecida:
PRB02-018 e OR (escolhe 1 entre os 3, no total); ST13-006 e AND/"1 each of"
(ate 1 de CADA um, ate 3 cartas).

**Busca ampla no cards_rows.csv confirmou so essas 2 cartas** tem a forma
"lista de 2+ nomes proprios logo apos 'play up to N'". Durante a
implementacao, 2 falsos-positivos apareceram via `diff_parser.py` e foram
excluidos com regras mais precisas (nao hardcode pra essas 2 cartas):
1. Bracket de CONDICAO antes de "play up to" vazando pro filtro (ex:
   EB03-029 "If your Leader is [Boa Hancock], play up to 1 {Amazon Lily}
   or {Kuja Pirates} type...") -- resolvido ancorando a deteccao de lista
   em `janela_apos_play` (comeca em "play up to N", nao na clausula
   inteira).
2. "[TipoA] or [TipoB] type" (10 cartas reais: EB03-024/EB03-029/
   OP02-037/OP02-040/OP06-031/OP07-020/OP14-043/OP14-047/OP14-116/P-091)
   sendo lido como 2 NOMES quando sao 2 TIPOS alternativos -- resolvido
   com lookahead negativo `(?!\s+type)` apos a lista inteira.

`filter_name` (singular) continua 100% intacto pras dezenas de outras
cartas -- o loop antigo de nome unico e o fallback exato de sempre, ativado
so quando a lista ancorada nao bate (confirmado via diff_parser.py: 0
regressao em qualquer outra carta do banco).

Novo campo `filter_names` (lista) + `each` (bool, marca semantica AND).
Engine: `eligible_cards.name_or_code` aceita agora `str|list|tuple` (OR
entre os nomes, mesma convencao de `filter_text`). 3 pontos de consumo de
`play_card` atualizados: `_on_ko_play_card_value` (estimador de valor),
`_step_is_viable` (checagem antes de pagar custo de ativacao), e o
executor real GRUPO 2. O executor real ganhou ramo novo pra `each`: joga
ate `count` de CADA nome da lista (loop por nome, independente), distinto
do ramo OR existente (pool compartilhado, ate `count` no total).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=2 (so as 2 cartas
certas) -> `gerar_dbs.py` + `snapshot_parser.py` (re-baseline limpo, 2614
cartas) -> `smoke_fast.py` com 8 asserts novos de EXECUCAO real cobrindo os
2 conectivos (OR joga so 1 dos 3 e respeita a condicao de Life face-up;
each joga os 3, e joga so os presentes quando falta 1 na mao) -> ambos
verdes -> `smoke_test.py` TODOS OS TESTES PASSARAM -> `smoke_test_broad.py`
7/7 partidas sem excecao. Registro completo em
`parser_audits/2026-07-17_prb02-018_st13-006_filter_names_lista.json`.

Nao verificado ao vivo ainda (nenhuma das duas cartas apareceu em log real
nesta sessao) -- linguagem condicional se o usuario reportar qualquer coisa
envolvendo PRB02-018/ST13-006 antes da proxima partida confirmar.

## 2026-07-17 (257) - Reexame da lacuna P-039/OP01-067/OP03-041 -- premissa incorreta descartada, bug REAL era outro (familia OP-03 de mill reativo)

Tarefa recebida como continuacao do handoff de sessao anterior: "generalizar
apply_conditional_keyword_passives() pra tambem executar buff_power/
debuff_cost/trash_from_deck_top condicionais, ja que hoje so keyword grants
(gain_blocker etc.) sao lidos de blocos 'passive' com 'conditions'". Essa
premissa **nao se sustentou** sob teste real -- investigado a fundo antes de
escrever qualquer linha:

- Existe um mecanismo BEM mais amplo que ja fazia isso, `EffectExecutor.
  apply_your_turn_buffs()` (chamado 1x por turno proprio em `main_phase`,
  ja existia ANTES desta sessao) -- executa QUALQUER step de um bloco
  'passive'/'your_turn' respeitando 'conditions' E 'don_requirement',
  despachando pra `_execute_step()` (o mesmo executor generico usado em
  todo o engine). Um censo amplo (217 candidatos brutos, cruzados manualmente
  contra hooks dedicados ja existentes: immunity, substitute_ko/removal,
  ko_on_opp_blocker, win_game_on_opp_blocker, lock_both_character_refresh,
  effective_hand_play_cost, is_attack_locked_self, etc.) reduziu pra so 2
  GAPs reais -- nenhum deles era P-039.
- **P-039 (Bellamy) NAO e bug.** Testado empiricamente (don_attached=2,
  vida=0): recebe +2000 power corretamente via apply_your_turn_buffs() ja
  existente. Nenhum fix necessario.
- **OP01-067 (Crocodile) e bug real, ISOLADO** (unico caso no banco pra essa
  forma: Character dando desconto de custo a OUTRAS cartas na mao, nao a
  si mesmo) -- "Give blue Events in your hand -1 cost" nunca aplica (parser
  cai no fallback `target='own_character'`, alem de `effective_hand_play_
  cost()` so ler auras `own_play_hand` de Stage, nunca de Character, e
  `_play_cost_rule_matches()` hardcodar `card_type != 'CHARACTER'`).
  **Usuario optou por NAO corrigir agora** (aprovou so o item abaixo) --
  fica registrado aqui pra nao se perder, caso surja de novo numa proxima
  varredura.
- **Familia de 5 cartas do set OP-03 e bug real, CORRIGIDO nesta sessao:**
  "When this Character's/Leader's attack deals damage to your opponent's
  Life, you may trash N cards from the top of your deck" (OP03-040 Nami
  Leader mill 1, OP03-041 Usopp mill 7, OP03-043 Gaimon mill 3 + self K.O.,
  OP03-047 Zeff mill 7, OP03-051 Bell-mere mill 7) caia em 'passive' comum
  -- apply_your_turn_buffs() disparava o mill INCONDICIONALMENTE a cada
  inicio do PROPRIO turno, mesmo sem nenhum ataque ter ocorrido (confirmado:
  Usopp milhava 7 cartas so por existir em campo). E um gatilho REATIVO
  amarrado a uma batalha que realmente conecta na vida do oponente, nao uma
  condicao continua.

**Fix:** extracao nova e antecipada em `parse_card_effect()`
(gerar_effects_db.py) que reconhece a frase-gatilho ANTES de qualquer
consumidor generico de 'passive', produz uma chave nova e distinta
`result['on_damage_to_life']` (com `don_requirement` e `self_ko` quando
aplicavel) e remove o trecho casado do texto usado pelo resto da funcao
(evita duplicacao/contaminacao no fallback/segmento-solto/pos-keyword).
Hook novo em `_execute_attack()` (decision_engine.py), na janela logo apos
o loop de dano de vida do Leader-alvo, gated por "pelo menos 1 vida
realmente removida nesta batalha" + `don_requirement` do ATACANTE
especifico -- reusa `_execute_step()` pra `trash_from_deck_top` e, pra
Gaimon, auto-K.O. o proprio atacante apos o mill. Achado colateral: Gaimon
tinha "If you do, trash this Character" modelado como `costs=[trash_self]`
(custo pago ANTES, semanticamente invertido, e nunca executado -- apply_
your_turn_buffs nao paga costs de 'passive') -- corrigido pra `self_ko:
True` no step, consequencia APOS o mill.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=5 (so as 5 cartas da
familia, nenhuma das 2614 cartas afetada). `gerar_dbs.py` + `snapshot_
parser.py` sincronizados. `smoke_fast.py`: teste dirigido novo com
EXECUCAO REAL de ponta a ponta via `_execute_attack` (Usopp so milha APOS
conectar, nao antes; sem DON!! x1 anexado NAO milha mesmo com dano
conectado; Gaimon milha e se auto-K.O.). Assercao antiga de OP03-041
(do commit af71492) atualizada pra apontar pra chave nova. `smoke_test.py`:
TODOS OS TESTES PASSARAM. `smoke_test_broad.py`: 7/7 (rodado por mexer em
`_execute_attack`, codigo central de toda batalha). Registro completo em
`scriptis_da_ia/parser_audits/2026-07-17_op03_familia_on_damage_to_life_mill.json`.

## 2026-07-17 (257) - OP10-026/027 Kin'emon: custo composto "place this Character and 1 [Kin'emon] ... from your trash at the bottom of your deck" (deferido desde 27/06) + generalizacao pra 5 cartas self-only descobertas na varredura

Pedido explicito do usuario (ver comentario deliberado no codigo perto de
`place_from_trash_bottom_deck`): implementar o custo composto do Kin'emon
(OP10-026/027) que ficava fora de escopo desde a auditoria de 27/06.
Confirmado via busca ampla no `cards_rows.csv` (regex `place this
character and`) que so essas 2 cartas usam a forma COMPOSTA exata.

Busca mais ampla (`place this (character|leader)`) revelou 3 cartas a
mais com a MESMA raiz gramatical, so que sem o parceiro do trash
(OP06-016, OP09-008, P-013) -- mesmo bug (custo inteiro ausente, tratado
como gratis). Usuario aprovou incluir no mesmo fix generico (pergunta via
AskUserQuestion). Essa segunda busca manual CRASHOU no meio (encoding
cp1252 do console ao tentar imprimir um char `−` de OP09-008/P-013) e
devolveu uma lista PARCIAL sem eu perceber -- so `diff_parser.py`
(comparando contra o snapshot pre-fix, apos escrever o regex novo)
revelou a lista COMPLETA e correta: **7 cartas**, 2 a mais do que a busca
manual tinha achado (OP12-080 e P-033). Licao: pra esse tipo de auditoria,
`diff_parser.py` (que re-parseia o banco inteiro programaticamente) e mais
confiavel do que grep manual no console -- nao confiar em busca manual
como fonte final de "achei tudo".

**Custo novo no parser (`gerar_effects_db.py`, `parse_costs`):**
`place_self_bottom_deck` -- move a PROPRIA carta (campo) pro fundo do
proprio deck, com campos opcionais `trash_partner_name`/
`trash_partner_count`/`trash_partner_power_eq|gte|lte` quando o texto
tambem exige um parceiro NOMEADO do trash junto (Kin'emon). Regex
forma-agnostica: aceita `at the bottom of your deck` e `at the bottom of
the owner's deck` como sinonimos (nao amarrado ao fraseado exato de
nenhuma carta-gatilho).

**Engine (`decision_engine.py`, `_pay_costs`):** pagamento ATOMICO --
preflight valida que o parceiro do trash existe ANTES de qualquer
mutacao (mesmo padrao ja usado por `place_from_trash_bottom_deck`); so
entao move o parceiro pro fundo do deck e por ultimo a propria carta via
`remove_character_from_field(..., 'deck_bottom')` (destino ja existente,
reusado). Custo tudo-ou-nada: se faltar o parceiro nomeado no trash, a
carta-fonte NAO vai pro fundo do deck sozinha (retorna False, efeito nao
dispara). Tambem adicionado desconto em `_score_activate_main`
(`place_self_bottom_deck` desconta `min(src.board_value()*8, 80)`, mesmo
criterio de `ko_own_character`) -- sem isso a IA trataria perder o
proprio personagem ativo do campo como "jogar carta gratis".

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=7 (as 7 cartas,
sem regressao); `gerar_dbs.py` sincronizado (2614 cartas); `smoke_fast.py`
1 teste novo com execucao real cobrindo custo pago com sucesso (Kin'emon
original + parceiro do trash pro fundo do deck, alvo jogado da mao),
custo falhando (sem Kin'emon do power certo no trash, nada mutado) e a
familia self-only (OP06-016); `smoke_test.py` TODOS OS TESTES PASSARAM;
`smoke_test_broad.py` 7/7 (rodado por mexer em `_pay_costs`/
`_score_activate_main`, codigo compartilhado). Registro completo em
`scriptis_da_ia/parser_audits/2026-07-17_op10-026_027_kinemon_place_self_bottom_deck.json`.

**Estado:** pronto pra commit. Nao testado ao vivo contra humano ainda
(so smoke/simulacao interna) -- ver
`memory/feedback_nao_declarar_resolvido_sem_partida_real.md`.

## 2026-07-17 (248-256) - Lote de 9 itens aprovado ("aprovo sim") -- correcoes de FORMA (conectivo/ordem/redacao) em mecanismos ja existentes

Continuacao imediata do lote de 11 (bloco 237-247). Usuario aprovou 9 novos
candidatos levantados do topo da lista de suspeitos. Ao contrario do lote
anterior (que revelou bugs SISTEMICOS grandes), este lote foi mais
"tradicional": cada item e uma variante de FORMA de um mecanismo ja
existente (conectivo "and" em vez de "or", ordem de clausulas invertida,
redacao direta-da-keyword em vez de prose) que o parser nao tolerava.

**248 -- ST22-005 (Kouzuki Oden):** custo COMPOSTO "rest 3 DON!! cards and
return 1 of your Characters other than this Character to the owner's
hand" -- so a parte do `rest_don` existia; a devolucao de Character
(`return_own_character_to_hand` com `exclude_self`) estava inteiramente
ausente. Mesma convencao ja usada por `place_from_trash_bottom_deck`
composto com `rest_self`.

**249 -- EB02-002 (Sabo):** "Up to 1 of your 'Revolutionary Army' type
Characters **other than [Sabo]** gains +2000 power" -- o filler "other
than [Nome]" quebrava o regex `m_select_buff` (buff de selecao filtrada),
caindo no fallback `target='self'` (Sabo se buffando). Generalizado
tolerando essa clausula (mesmo padrao ja usado pra "and that card"/"on
your field"), com `exclude` propagado ao executor de `select_filtered`
(que ainda nao suportava exclusao por nome).

**250 -- EB02-007:** "Up to a total of 3 of your Leader **and**
Character cards gain +1000 power" -- o conectivo "and" (em vez do "or" ja
tolerado em `leader_or_character`) nunca era reconhecido, virando um buff
incondicional so no Leader, sem selecao nem count. Generalizado: "your
leader and character" agora tambem mapeia pra `leader_or_character`, e
esse alvo ganhou extracao de `count` (N>1) + loop no executor (antes so
escolhia 1, ignorando o campo count).

**251 -- EB02-028 (Portgas Ace):** clausula final "and play up to 1
Character card with a cost of 2 from your hand rested" inteira ausente
(distinta do play-do-deck-revelado ja coberto na mesma carta). O executor
GRUPO 2 de `play_card` ja suportava jogar da mao com filtro E `enters_rested`
(campo ja existente, nunca consumido por nenhum parser ate agora) --
so faltava o parser produzir o step.

**252 -- EB01-053 (Gastino):** "Give up to **a total of 2** of your
opponent's Leader or Character cards -3000 power" -- a extracao de count>1
so existia pra `target='opp_character'` (achado 15/07), nunca pra
`opp_leader_or_character`, e nao tolerava "a total of" (so "up to N"
puro). Generalizado nos dois eixos + loop de selecao multipla no executor
(que so escolhia 1 alvo antes, ignorando count).

**253 -- EB03-049:** duas clausulas de play_card encadeadas ("play up to 1
{Tipo} type Character card with a cost of 6 or less **and** up to 1
{Tipo} type Character card with a cost of 4 or less from your hand or
trash") -- `parse_play_generic` usa `re.search` (1 match so), a 2a
clausula nunca era vista. Nova deteccao de continuacao logo apos o 1o
match, reaproveitando filter_type/source_alt do 1o step.

**254 -- EB03-050 (Conis)/OP04-115/EB04-024:** `gain_double_attack`/
`gain_unblockable` (auto-concessao) deveriam ser SELECAO filtrada
("Up to 1 of your {Tipo} type Characters gains [Double Attack/
Unblockable]") -- mesma classe de bug ja corrigida 16/07 pra Blocker/
Rush, nunca generalizada pras outras 2 keywords. Nova acao
`select_grant_double_attack` (Double Attack nunca teve mecanismo de
selecao); Unblockable reusa `select_grant_unblockable_turn` JA EXISTENTE
(so faltava reconhecer a forma DIRETA da keyword "gains [Unblockable]",
alem da prose "opponent cannot activate Blocker" ja coberta) -- guarda
adicionada pra nao duplicar com o `gain_unblockable` generico.

**255 -- EB03-061 (Uta) + generalizacao (OP06-020/OP09-036/ST26-002):**
"rest up to 1 of your opponent's **DON!! cards or Characters** with a
cost of 4 or less" (DON mencionado PRIMEIRO) -- so a ordem inversa
("Characters or DON!! cards", ja coberta 15/07) era reconhecida. Ao
adicionar a nova ordem, achado bug de PRIORIDADE: o check generico de
`rest_opp_don` roda ANTES na funcao e interceptava essa MESMA clausula
por engano (retorno antecipado, perdendo a alternativa "or Characters")
-- corrigido reordenando pra checar a forma composta primeiro. Generalizou
pra mais 3 cartas com a mesma ordem invertida.

**256 -- EB04-056 (Pacifista):** "If you have [Jewelry Bonney] **and**
you have 0 Life cards, gains [Blocker]" -- condicao composta
(presenca-por-nome + vida exata) ficou DELIBERADAMENTE na fila desde
15/07 (comentario no codigo: "EB04-056 permanece na fila ate essa
familia ser corrigida por inteiro") ate esta sessao resolver a familia
completa com uma clausula combinada dedicada.

**Validado (lote completo):** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=15
(auditado item a item). `gerar_dbs.py` + `snapshot_parser.py` 0/0/0.
`smoke_fast.py`: 6 testes dirigidos novos com EXECUCAO REAL cobrindo os 9
itens + as 4 cartas da generalizacao de ordem. `smoke_test.py`: TODOS OS
TESTES PASSARAM. `smoke_test_broad.py`: 7/7 (rodado por mexer em codigo
central -- `parse_rest_opp` reordenado, `buff_power`/`leader_or_character`
com count>1, `play_card` com 2a clausula encadeada). Registro em
`parser_audits/2026-07-17_lote_9_itens_st22-005_a_eb04-056.json`.

Suspeitos: 259 -> 247.

## 2026-07-17 (237-247) - Lote de 11 itens aprovado ("levar os 11") -- varios bugs sistemicos descobertos no caminho

Usuario aprovou de uma vez os 11 candidatos levantados apos o lote anterior
(bloco 236). Um (OP09-118) confirmado FALSO-POSITIVO durante a implementacao
(condicao "0 Life cards" ja hardcoded no engine em `_execute_attack`, so nao
aparece no JSON parseado -- nao precisou de fix). Os outros 10 generalizaram
para familias BEM maiores que a carta-gatilho original, e a investigacao de
cada um revelou 3 bugs SISTEMICOS pre-existentes nao relacionados ao escopo
original:

**237 -- EB02-061/OP16-060:** custo NOVO `return_active_don_to_don_deck`
("you may return N of your active DON!! cards to your DON!! deck: efeito")
-- distinto de `don_minus` ja existente (que PREFERE devolver DON ja
restado/gasto; aqui o texto exige DON ATIVO especificamente).

**238 -- ST17-005/EB03-034/ST17-001:** "place N cards from your hand at the
top of your deck" (SEM "or bottom") -- acao/custo NOVO `hand_to_deck_top`/
`place_hand_top_deck`, TOPO do deck (fim da lista), distinto do
`hand_to_deck` existente (sempre fundo).

**239 -- EB01-001 + bug sistemico #1 (10+ cartas):** condicao NOVA
`other_char_cost_gte_type` (variante por TIPO da `other_char_cost_gte`
existente). Ao investigar o Counter irmao de OP12-098 (mesma frase "Then,
if [cond], that card gains an additional +N power"), achado bug MAIOR: o
2o `buff_power` de uma FAMILIA INTEIRA de Counter events (EB03-020,
OP01-029, OP04-095, OP05-114, OP06-038, OP07-035, OP07-095, OP11-059,
OP12-098, OP14-078) mirava `target='self'` (o proprio Event card, que nao
luta -- buff inutil) em vez do MESMO alvo escolhido pelo 1o buff
(`leader_or_character`). Corrigido: novo alvo `target='selected'`
(consistente com o resto do engine), com `_last_selected` agora tambem
gravado pelo branch `leader_or_character`. `_counter_event_power_plan`
(mecanismo separado de simulacao "vale usar este Counter?") usava
`target=='self'` como MARCADOR interno pra essa mesma semantica --
atualizado pra aceitar `'selected'` tambem (pego pelo `smoke_test.py`,
2 testes antigos que validavam o comportamento ANTIGO por engano).

**240 -- EB03-009 + bug sistemico #2:** alvo "up to 1 of your Characters
with no base effect" caia em auto-buff (`target='self'`) porque o custo
"rest this Character" contaminava a deteccao de alvo (checada ANTES de
"of your characters" na mesma janela) -- reordenado, mesma classe de bug
ja documentada pra 'leader' (contaminacao cruzada custo/condicao->alvo).
Ao consertar, achado bug PRE-EXISTENTE mais serio: `filter_no_effect`
SEMPRE retornava True (`get_card_effects()` ja retorna o dict desempacotado
de efeitos; chamar `.get('effects')` NELE de novo sempre dava `None`) --
o filtro nunca filtrava nada, tratando QUALQUER carta como "sem efeito
base". Corrigido em 3 lugares (buff_power own_character, buff_cost/
debuff_cost, play_from_deck) -- afeta tambem OP03-091, EB02-022, EB03-003,
EB03-007, EB03-039 (nunca filtravam de verdade antes).

**241 -- EB02-056:** condicao NOVA `opp_chars_lte` (simetrica a
`opp_chars_gte` existente, so cobria "or more"). Clausula usa conector
"and if [cond], [efeito]" SEM ponto (distinto do `split_then_if` existente,
que exige ponto antes do "if") -- novo `SPLIT_AND_IF_RE`, mesma semantica
de anexar a condicao SO ao step seguinte.

**242 -- EB03-006 (dado bruto) + bug sistemico #3 (65+ cartas):** WebSearch
contra o texto oficial confirmou "-5000 power" (sinal de menos perdido no
scrape do cards_rows.csv) -- corrigido como dado, nao parser (mesma
metodologia do bloco 227, OP15-009). Ao validar, achado bug SISTEMICO
MUITO maior: `'[once per turn]' in t_low` checava o TEXTO INTEIRO da carta
em vez do bloco do trigger ATUAL -- qualquer carta com 2+ blocos onde SO
UM tinha a tag contaminava TODOS com `once_per_turn=True`. Corrigido pra
`in block` (ja recortado por trigger_pattern). 65+ cartas confirmadas
afetadas (amostra: EB01-002, EB02-035, EB03-001/008/026/061, EB04-001/
007/021/032/036/043, OP01-040, OP04-024/060, OP05-016/032/041/119,
OP06-055/062/111, OP07-057/071, OP08-008/056/105/111, OP09-023,
OP10-001/003/037/071/086, OP11-031, OP12-041/044/053/077/081, OP13-057,
OP14-016/029/061/080/105/114/119, OP15-001/002/008/023/041/114, OP16-063/
065/080/094, P-096, PRB02-002, ST01-012/016, ST02-010, ST12-010, ST13-002,
ST19-003/004, ST20-002, ST21-003, ST22-012, ST27-001, ST28-004, ST29-012).

**243 -- OP14-009 (Trafalgar Law):** corpo inteiro ausente -- custo
`trash_from_hand` count=2 + mecanica NOVA `swap_base_power` com alvo
`leader_and_own_character` (troca o power BASE entre o Leader e o melhor
Character proprio por board_value, generalizando o `swap_base_power`
ja existente que so cobria 2 Characters ou 2 chars do oponente).

**244 -- OP12-016 + familia (EB04-009/OP12-017/OP12-019) + bug sistemico
#4 (9+ cartas):** custo NOVO `give_don_to_named` ("you may give N active
DON!! cards to 1 of your [Nome]: efeito", familia "Silvers Rayleigh") +
efeito NOVO `select_grant_unblockable_turn(target='don_recipient')` --
alvo = quem recebeu o DON!!, sem step de selecao proprio no texto (gap ja
identificado e DEFERIDO em sessao anterior, ver docstring de
`parse_select_unblockable_turn`). Ao implementar, achado bug SISTEMICO
descoberto: a guarda que evita "your opponent activates [Blocker]" de virar
`keyword_blocker` nativo por engano (achado 15/07, OP09-118) tinha um erro
de REGEX (`(?:cannot|can't )?` sem espaco na 1a alternativa, nunca casava)
E nao tolerava a NEGACAO "cannot/can't activate" (a forma REAL mais comum
de "torna alguem unblockable") -- corrigido, 9+ cartas confirmadas ganhando
Blocker nativo bogus por engano: OP05-016, OP06-055, OP08-111, ST01-012,
OP12-077, ST01-016, ST21-003, OP13-057 (fora as 4 da familia Rayleigh).

**245 -- OP16-118 (Portgas Ace):** mecanica estatica NUNCA VISTA --
"The counter of all of your Character cards with N power in your hand
becomes +M" (modifica o Counter IMPRESSO de cartas na MAO, filtro por
power exato). Nova acao `set_hand_counter_by_power` + helper
`effective_counter(card, owner)` no engine, consumido nos pontos
DECISIVOS de "vale usar como Counter" (`counter_in_hand`/`pick_counters`)
-- escopo deliberadamente estreito, NAO tocado nas ~10 heuristicas de
scoring secundarias que leem `card.counter` direto (seria over-engineering
pra 1 carta nao usada em nenhum deck salvo).

**246 -- ST01-017 (Thousand Sunny, Stage):** `target='self'` sem sentido
pra um Stage (nao luta) -- corrigido pra `select_filtered` (mesmo
mecanismo ja usado por OP07-057/EB02-021), com o filtro de tipo "of your"
tornado OPCIONAL (unica carta sem essa palavra, posse implicita via
"on your field" no fim da frase) e "on your/the field" tolerado como
locucao opcional antes de "gains".

**Validado (lote completo):** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=101
(auditado item a item, nenhuma regressao). `gerar_dbs.py` +
`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 9 testes dirigidos novos com
EXECUCAO REAL cobrindo cada item + as 4 descobertas sistemicas.
`smoke_test.py`: TODOS OS TESTES PASSARAM (2 testes preexistentes
corrigidos pra refletir o comportamento CORRETO pos-fix do
`_counter_event_power_plan`). `smoke_test_broad.py`: rodado (mudancas em
codigo central -- buff_power own_character, once_per_turn scoping,
keyword nativa guard, `_counter_event_power_plan` -- usado por TODAS as
2614 cartas). Registro consolidado em
`parser_audits/2026-07-17_lote_11_itens_op09-118_a_op16-118.json`.

Suspeitos: 271 -> 259 (11 itens do lote, alguns cobrindo varias cartas
cada; a queda real de COBERTURA e muito maior que a diferenca numerica
sugere, por causa das 3 descobertas sistemicas que corrigiram dezenas de
cartas sem elas terem aparecido individualmente nesta lista -- o audit
so conta numeros ausentes no texto, nao bugs de EXECUCAO como
once_per_turn/filter_no_effect/keyword_blocker).

**Achado colateral NAO corrigido (fora de escopo, flagueado via spawn_task
pra sessao dedicada):** `smoke_test_broad.py` (decks aleatorios, seed
fixo=42) crashou UMA VEZ com `TypeError: '>' not supported between
instances of 'int' and 'str'` dentro de `eligible_cards(cost_lte=...)`,
nao reproduzido de forma determinista em ~15 tentativas seguintes (nem
variando PYTHONHASHSEED 0-4). Causa raiz identificada por inspecao de
codigo (nao por reproducao ao vivo): `play_card.cost_lte` pode ser a
STRING sentinela `'don_count_opp'`/`'don_count_self'` (custo dinamico =
numero de DON no campo, 4 cartas: OP13-099, OP08-098, OP11-022, P-090),
resolvida em runtime por `EffectExecutor._resolve_cost_lte()` -- mas
DEZENAS de outros pontos do engine leem `step.get('cost_lte')` DIRETO
(sem resolver) e comparam com `card.cost`, quebrando se o valor for uma
dessas strings. Bug PRE-EXISTENTE, nao introduzido nesta sessao (nenhum
item do lote toca `play_card`/`cost_lte`) -- mas relevante pra
estabilidade ao vivo (pode crashar uma partida real). Task de background
criada com o levantamento completo dos call sites suspeitos.

## 2026-07-17 (236) - OP07-091: ultimo item do lote de 10 -- place_trash_matching_bottom_deck + buff por contagem real

**236 -- OP07-091 (unica carta no banco):** "[When Attacking] Trash up
to 1 of your opponent's Characters with a cost of 2 or less. Then,
place any number of Character cards with a cost of 4 or more from your
trash at the bottom of your deck in any order. This Character gains
+1000 power during this turn for every 3 cards placed at the bottom of
your deck." -- duas lacunas: (1) "place any number... from your trash
at the bottom of your deck" e uma acao de CONTAGEM VARIAVEL (jogador
escolhe quantas mover), distinta do custo `place_from_trash_bottom_deck`
(numero FIXO) ja existente -- nova acao `place_trash_matching_bottom_deck`
(parser+executor), move TODAS as Characters elegiveis (cost_gte) do
proprio trash pro fundo do deck (maximiza o buff seguinte); (2) o buff
seguinte escala pelo RESULTADO REAL desse MESMO step ("for every 3
cards placed"), nao por um estado estatico do tabuleiro como todas as
fontes ja existentes de `buff_power_per_count` (trash/hand/DON/
own_characters/unique_names) -- nova fonte `placed_bottom_deck_this_effect`,
lida via `EffectExecutor._last_moved_count` (novo atributo, resetado em
`execute()` junto de `_last_selected`, preenchido pelo executor do
step anterior) -- mesmo padrao ja usado por `_last_selected`/
`_last_trashed_names` pra comunicacao entre steps do MESMO bloco.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1 (so OP07-091).
`gerar_dbs.py` + `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste
novo com EXECUCAO real de ponta a ponta (custo trashado; 4 Characters
cost>=4 movidas pro fundo do deck; 2 Characters baratas + 1 Event
permanecem no trash; buff = floor(4/3)*1000 = 1000). `smoke_test.py`:
TODOS OS TESTES PASSARAM. `smoke_test_broad.py`: 7/7 (rodado por mexer
em `execute()`/`buff_power_per_count`, codigo compartilhado por toda a
base). Registro em
`parser_audits/2026-07-17_op07-091_place_trash_matching_bottom_deck.json`.

Suspeitos: 272 -> 271.

**Lote de 10 itens (aprovado pelo usuario, "quero que implemente tudo")
CONCLUIDO com este bloco.** Itens do lote: OP16-001/EB03-001/OP04-001/
OP12-007/PRB01-001 (select_grant_rush, bloco 229), OP16-043 (bloco 230),
OP14-120 (bloco 231), PRB02-010 (bloco 232), ST13-001 (bloco 233),
P-039/OP01-067/OP03-041/OP09-118 (generalizacao pos-keyword, bloco 234,
expansao de escopo aprovada no meio do lote), ST10-006 (bloco 235),
OP07-091 (bloco 236, este). Proximo passo: reportar ao usuario e
perguntar se continua a varredura (1-por-1 ou outro lote de 10) ou
pausa aqui.

## 2026-07-17 (229-230) - Lote de 10 itens aprovado pelo usuario -- select_grant_rush (5 cartas) + bounce typo (1 carta)

Usuario pediu pra fazer lotes de 10 aprovacoes de uma vez (em vez de
1-por-1) pra agilizar. Levantados 10 itens do topo da lista, aprovados
todos de uma vez. Primeiros 2 fechados neste bloco:

**229 -- select_grant_rush (5 cartas):** `gains [Rush]` com clausula de
SELECAO de outro Character (por tipo/nome/custo/exclusao) sempre virava
`gain_rush` (auto-buff, sem selecao) -- bug de comportamento real.
OP16-001 (Leader): OR entre nome exato (Monkey.D.Luffy) e tipo+power
(Whitebeard Pirates, 8000+). Busca ampla achou mais 4: EB03-001,
OP04-001, OP12-007, PRB01-001 -- todas com o MESMO bug. Nova acao
`select_grant_rush` (parser+executor), mesma familia de
`select_grant_blocker` (16/07). Achado NOVO no meio do fix: 2 cartas
(EB03-001, PRB01-001) usam "without a [Tag] effect" (tags diferentes:
When Attacking, On Play) -- campo novo `filter_no_tag`, DISTINTO de
`filter_no_effect` ja existente (esse exige NENHUM efeito parseado;
`filter_no_tag` so exige a ausencia de UMA tag especifica).

**230 -- OP16-043 (Usopp):** typo "tour" em vez de "your" em
"[On K.O.] Return up to 1 of tour opponent's Characters..." -- nunca
tolerado nas 3 regexes de `parse_bounce`. So 1 carta no banco.

**Validado (ambos):** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=6 (5+1).
`gerar_dbs.py` + `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 2 testes
dirigidos novos com EXECUCAO real. `smoke_test.py`: TODOS OS TESTES
PASSARAM. `smoke_test_broad.py`: 7/7. Registros em
`parser_audits/2026-07-17_op16-001_select_grant_rush.json` e
`parser_audits/2026-07-17_op16-043_bounce_typo_tour.json`.

Suspeitos: 282 -> 279.

**231 -- OP14-120 (Crocodile):** condicao OR "custo==0 ou custo>=8" no
campo do OPONENTE ("1ith" = typo de "with"), nova `opp_char_cost_eq_or_gte`
(mesma familia de `don_on_field_zero_or_gte`, bloco 228).

**232 -- PRB02-010 (Charlotte Pudding):** faixa de power "6000 to 8000"
faltando em `play_card` (mesma FORMA ja corrigida em
`parse_play_from_trash`/`parse_look_at`). Executor tambem nao repassava
`power_gte` pro play_card GRUPO 2 (so `power_lte`/`power_eq`) --
corrigido junto.

**Validado (231+232):** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=2.
`smoke_fast.py`: 2 testes novos com EXECUCAO real. `smoke_test.py`/
`smoke_test_broad.py`: todos passaram. Registros em
`parser_audits/2026-07-17_op14-120_opp_char_cost_eq_or_gte.json` e
`parser_audits/2026-07-17_prb02-010_play_card_power_range.json`.

Suspeitos: 279 -> 277.

**233 -- ST13-001 (Sabo):** filtro custo+power (cost>=3, power>=7000)
faltando na selecao de "qual Character vai pra vida" em `gain_life`
(source=own_field) -- so o `power_eq` exato de Kawamatsu ja existia
la, nunca `cost_gte`/`power_gte`.

**234 -- Generalizacao "segmento pos-keyword" (P-039 e mais 3):**
descoberta durante o P-039, expandiu o escopo do lote (aprovado pelo
usuario apos pergunta explicita). O mecanismo "texto DEPOIS do
reminder parenteses de uma keyword nativa" so existia pra `[Blocker]`
(achado 01/07) -- generalizado pra `[Rush]`/`[Rush: Character]`/
`[Double Attack]`/`[Banish]`/`[Unblockable]`. 3 cartas com conteudo
REALMENTE ausente: P-039 (buff condicionado a Life==0, apos
`[Banish]`), OP01-067 (debuff_cost, apos `[Banish]`), OP03-041
(trigger reativo de mill, apos `[Rush]`). Efeito colateral: o
workaround especifico de `win_game_on_opp_blocker` (existia so por
essa mesma lacuna, limitado a `[Blocker]`) ficou redundante e foi
removido -- generalizar sem remove-lo duplicava o step em OP09-118
(pego pelo diff_parser antes do commit).

**235 -- ST10-006 (item original 9 do lote): trigger reativo NOVO.**
Alem do gap de posicionamento (item 234), essa clausula ("When your
opponent activates a [Blocker], K.O. up to 1...") e um TRIGGER REATIVO
de combate que nao tinha NENHUM mecanismo de execucao -- so existia o
precedente `win_game_on_opp_blocker` (mesma janela de gatilho, achado
15/07). Pior ainda: uma vez posicionado em 'passive', o parser
GENERICO de K.O. capturava a clausula como um `ko` incondicional --
como NENHUM codigo executa acoes arbitrarias a partir de 'passive' (so
keyword grants/substitute/immunity/win_game_on_opp_blocker sao lidos
de la), esse dado ficaria PARSEADO mas MORTO (nunca dispararia em
partida real). Nova acao dedicada `ko_on_opp_blocker` (nao um `ko`
generico) + hook de execucao NOVO em `_execute_attack`, na MESMA janela
de `win_game_on_opp_blocker`. `once_per_turn` rastreado via flag NOVA
no Card (`ko_on_opp_blocker_used_this_turn`, resetada em
`refresh_phase`) -- nao `EffectExecutor._once_used` (descartavel entre
instancias, nao sobreviveria entre ataques do mesmo turno neste hook
fora do `execute()` normal).

**Validado (233+234+235):** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=6.
`gerar_dbs.py` + `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 2 testes
novos com EXECUCAO real (gain_life com filtro combinado; K.O. reativo
de PONTA A PONTA via `_execute_attack`, incluindo guarda de
nao-duplicacao pro OP09-118). `smoke_test.py`/`smoke_test_broad.py`:
todos passaram (broad rodado na hora, mudanca em codigo central usado
por TODAS as 2614 cartas). Registros em
`parser_audits/2026-07-17_p-039_pos_keyword_generalizado.json` e
`parser_audits/2026-07-17_st10-006_ko_on_opp_blocker.json`.

Suspeitos: 277 -> 272.

**Item restante do lote (aguardando implementacao, ja aprovado):**
OP07-091 (colocar QUALQUER NUMERO no fundo do deck + buff escalado
pelo resultado do mesmo efeito).

## 2026-07-17 (228) - OP05-060/ST10-002: condicao OR "0 ou N+ DON no campo" nunca reconhecida

Continuacao da varredura (bloco 227), aprovado explicitamente pelo
usuario antes de implementar. Monkey.D.Luffy (OP05-060 e ST10-002,
mesmo lider em sets diferentes): "If you have 0 or 3 or more DON!!
cards on your field, add up to 1 DON!! card...". Condicao OR de dois
limiares DESCONECTADOS (exatamente 0 OU >=N, excluindo 1 ate N-1)
nunca era reconhecida -- distinta de um INTERVALO (gte+lte com AND
excluiria justamente o 0, que e o caso que a carta quer incluir). O
`add_don` disparava sempre, ignorando a contagem real de DON no campo.

Nova condicao `don_on_field_zero_or_gte`, adicionada nas 3 funcoes de
checagem de condicao do engine (`_hand_cost_conditions_match`,
`EffectExecutor._check_conditions`, `_effect_conditions_met`) pra
cobrir todos os pontos onde `don_on_field_gte`/`lte` ja sao checados.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=2. `gerar_dbs.py`
+ `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste dirigido novo
com EXECUCAO real (0 DON dispara; 2 DON -- nem 0 nem >=8 -- NAO
dispara; 8 DON dispara). `smoke_test.py`: TODOS OS TESTES PASSARAM.
`smoke_test_broad.py`: 7/7. Registro em
`parser_audits/2026-07-17_op05-060_don_zero_or_gte.json`.

Suspeitos: 282 -> 282 (ST10-002 sai da lista por completo; OP05-060
continua com um "0" residual, cardinalidade implicita do proprio
limiar da condicao -- mesmo padrao de falso-positivo ja documentado,
nao um gap real).

## 2026-07-17 (227) - OP05-032 (Pica): substitute_ko com filtro de custo+exclusao, preso no timing errado

Fechamento do item pendente dos blocos 225/226 (aprovado explicitamente
pelo usuario). Pica: "[Once Per Turn] If this Character would be
K.O.'d, you may rest up to 1 of your Characters with a cost of 3 or
more other than [Pica] instead." Dois problemas, um mais serio que o
outro:

1. **Filtro de custo**: nenhum padrao de `_parse_substitute_cost`
   tolerava "up to" + `cost_gte` + exclusao por nome juntos.
2. **BUG ESTRUTURAL mais serio** (achado durante a implementacao, nao
   so filtro perdido): como a clausula vem logo apos "[End of Your
   Turn] (1): Set active." sem tag formal propria, ela ficava PRESA
   dentro do bloco `end_of_turn` -- e `try_substitute()` SO verifica
   os timings `passive`/`opp_turn`/`your_turn`, NUNCA `end_of_turn`.
   Mesmo reconhecendo o custo corretamente, a substituicao ficaria
   SILENCIOSAMENTE INERTE (nunca disparando) se so o item 1 fosse
   corrigido. Mesma CLASSE de bug ja corrigida em 16/07 pra
   `when_attacking` (OP12-081) -- aqui em `end_of_turn`.

Fix: (a) novo padrao de custo com `cost_gte`/`cost_lte`/`exclude`
mapeado pra `rest_own_character`, "up to" tambem tolerado nos 3
padroes irmaos por consistencia de forma; (b) `end_of_turn` mudou de
`LOOKAHEAD_DELIM` pra `LOOKAHEAD_DELIM_OU_ONCE` (parando em "[Once Per
Turn]"), e uma NOVA entrada em `trigger_patterns` (trigger_name=
'passive') ANCORADA exigindo "[end of your turn]...clausula" como
prefixo literal -- nao um padrao generico, pra nao conflitar com as
~30 outras cartas no banco que ja tem essa MESMA clausula de
substituicao capturada certo por `segmento_solto` (quando vem no
INICIO do texto, sem tag antes). Executor: `rest_own_character` agora
aceita `cost_gte`/`cost_lte`/`exclude` (antes escolhia QUALQUER
character do campo, sem filtro nenhum).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1 (so OP05-032;
confirmado que NENHUMA das ~30 cartas com a mesma clausula de
substituicao mudou). `gerar_dbs.py` + `snapshot_parser.py` 0/0/0.
`smoke_fast.py`: 1 teste dirigido novo com EXECUCAO real de PONTA A
PONTA via `try_any_substitute`/`_execute_step('ko')` -- Pica sobrevive
ao K.O. restando o candidato elegivel; sem candidato elegivel, Pica E
K.O.'d normalmente. `smoke_test.py`: TODOS OS TESTES PASSARAM.
`smoke_test_broad.py`: 7/7 (rodado na hora, mexeu em codigo central
compartilhado). Registro em
`parser_audits/2026-07-17_op05-032_pica_substitute_ko.json`.

Suspeitos: 283 -> 282 (Pica sai da lista por completo, ambos os gaps
resolvidos).

Contexto da sessao (blocos 225-227): o usuario pediu pra mapear a
familia de substituicao/protecao contra remocao citando 9 cartas
especificas (Bonney, Koby x3, Laboon, Koushirou, Tashigi x3) -- todas
JA estavam corretas, confirmando que a infraestrutura
substitute_ko/substitute_removal (auditoria de 01/07) e robusta. Pica
era o unico gap real da familia, agora fechado. Durante a analise,
usuario tambem apontou um erro de DADO BRUTO (custo do OP15-009,
corrigido no bloco 226) que NAO era sistemico (19/20 cartas
verificadas contra fonte externa bateram certinho).

## 2026-07-17 (226) - OP15-009: erro de DADO BRUTO no custo (nao e bug de parser)

Achado durante a analise pedida no bloco 225 (mapear a familia de
"substituicao"/protecao contra remocao, citada pelo usuario com
cartas especificas: Bonnie/Bonney, Koby, Laboon, Smoker, Koushirou,
Koby lider). Ao verificar OP15-009 (Koby), o usuario mandou foto real
da carta mostrando **custo 1**, mas `cards_rows.csv` tinha
`card_cost=4` -- **erro na raspagem do banco**, nao um bug de regex/
engine como todo o resto desta sessao.

**Checagem sistemica pedida pelo usuario ANTES de corrigir**: amostra
de 16 cartas aleatorias (seed=42) + 3 Tashigi (sugeridas pelo usuario
como exemplos adicionais da familia de substituicao) + 4 vizinhas de
OP15-009 no mesmo set -- todas as 19 verificadas via WebFetch contra
onepiece.limitlesstcg.com bateram custo/power exatos. **19/20 corretas,
so OP15-009 errada** -- confirma que NAO e um problema sistemico de
raspagem, e um erro isolado nesta carta.

**Achado colateral relevante**: ao verificar TODAS as cartas da familia
de substituicao citadas pelo usuario (Bonney OP15-105, Koby OP15-009/
EB04-044/OP11-001-lider, Laboon OP15-035, Koushirou OP12-027, Tashigi
EB03-018/OP10-032/OP14-029 -- 9 cartas no total), **nenhuma tinha bug
de parser** -- a infraestrutura `substitute_ko`/`substitute_removal`
(de uma auditoria grande em 01/07) e robusta e ja cobre essa familia
inteira corretamente. O UNICO gap real nessa familia continua sendo a
Pica (OP05-032), ainda pendente de aprovacao/implementacao (ver bloco
225): "rest UP TO 1 of your Characters with a cost of 3 or more other
than [Pica] instead" -- combinacao de "up to" + custo + exclusao por
nome que nenhum dos ~15 padroes existentes cobre.

**Correcao aplicada**: `card_cost` de OP15-009 corrigido de 4 para 1
direto em `cards_rows.csv`, seguido de `gerar_dbs.py` pra propagar.
NAO e mudanca em `gerar_effects_db.py` -- e correcao de dado de
origem, mas ainda precisou de registro em `parser_audits/` (o hook de
pre-commit bloqueia qualquer mudanca em `card_effects_db.json`,
independente da causa).

**Validado:** `gerar_dbs.py` rodado, `card_effects_db.json['OP15-009']
['cost'] == 1` confirmado. `smoke_fast.py` + `smoke_test.py`: TODOS OS
TESTES PASSARAM (nenhum teste dependia do custo antigo). Registro em
`parser_audits/2026-07-17_op15-009_erro_dado_bruto_custo.json`.

**Pendente:** o fix da Pica (item 2, mencionado no bloco 225) segue
aguardando aprovacao explicita do usuario antes de implementar.

## 2026-07-17 (225) - OP05-032/OP05-119: atalho "(N):" de custo DON sem texto explicativo padrao

Continuacao da varredura (bloco 224), agora com aprovacao explicita
carta-a-carta a pedido do usuario (ver
memory/feedback_aprovar_antes_de_cada_fix_do_parser.md). OP05-032
(Pica): "[End of Your Turn] (1): Set this Character as active." -- o
atalho "(N):" de custo em DON!! (ja reconhecido em outras cartas
quando acompanhado do texto explicativo "(You may rest the specified
number of DON!! cards in your cost area.)") nunca era reconhecido
quando vinha SEM essa explicacao.

**Correcao de rumo durante a investigacao**: a primeira tentativa
tratou "(1)" como `don_requirement` (semantica de "[DON!! xN]", exige
DON ANEXADO na propria carta) -- ERRADO, corrigido ANTES do commit ao
confirmar contra OP03-022 (mesmo atalho "(1)", mas com a explicacao
presente) que a semantica real e `rest_don` (custo de restar DON do
cost area, campo totalmente separado de don_requirement). Census: so
2 cartas usam o atalho sem a explicacao (OP05-032, OP05-119).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=2. `gerar_dbs.py`
+ `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste dirigido novo
com EXECUCAO real (sem DON disponivel, custo nao pago, habilidade nao
dispara; com 1 DON, custo pago e habilidade dispara). `smoke_test.py`:
TODOS OS TESTES PASSARAM. `smoke_test_broad.py`: 7/7. Registro em
`parser_audits/2026-07-17_op05-032_atalho_don_bare.json`.

Suspeitos: 283 -> 283 (total nao muda -- OP05-032 continua na lista
pelo segundo gap desta mesma carta, a substituicao de K.O. com filtro
de custo+exclusao, ainda em analise/aguardando aprovacao do usuario;
ver secao "Mapeamento de mecanismos de substituicao" abaixo).

**Pendente, em analise (pedido do usuario, nao implementado ainda):**
o usuario pediu pra mapear e separar por familia os varios mecanismos
de "substituicao" (rest, debuff, dano na vida, etc.) ja existentes no
parser (`substitute_ko`/`substitute_removal`, ver `_parse_substitute_cost`
em gerar_effects_db.py), citando cartas especificas pra investigar:
Bonnie (custo 1 amarela), Koby (custo 1 vermelha), Laboon (custo 1
verde), Smoker (custo 3 verde), Koushirou (verde, Blocker), Koby
lider (preto e vermelho). Analise em andamento, aguardando dados
antes de reportar/pedir aprovacao pra qualquer implementacao.

## 2026-07-17 (224) - OP12-001 e familia: custo "reveal N Events from your hand" nunca reconhecido (5 cartas)

Continuacao da varredura (bloco 223), com aprovacao explicita do
usuario pra continuar mais uma sessao no mesmo ritmo (pedido: perguntar
antes de cada carta/familia daqui pra frente). OP12-001 (Silvers
Rayleigh): "You may reveal 2 Events from your hand: Up to 1 of your
Characters with 4000 base power or less gains +2000 power during this
turn." -- o custo (revelar 2 Events, prova de posse, nao remove nada
da mao) nunca era reconhecido. O buff disparava de graca.

3a variante do custo `reveal_from_hand` ja existente (as outras 2 ja
cobriam filtro de tipo e Character+power exato) -- so faltava a
variante filtrada por card_type=EVENT direto. Busca global achou 5
cartas: OP12-001, OP12-003, OP12-004, OP12-009, OP12-015.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=5. `gerar_dbs.py`
+ `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste dirigido novo
com EXECUCAO real (so 1 Event na mao -- custo nao pago, buff nao
dispara; com 2 Events -- custo pago sem remover nada, buff dispara).
`smoke_test.py`: TODOS OS TESTES PASSARAM. `smoke_test_broad.py`: 7/7.
Registro em `parser_audits/2026-07-17_op12-001_reveal_events_custo.json`.

Suspeitos: 286 -> 283.

## 2026-07-17 (223) - OP10-047 e familia: custo "return N of your [Tipo] Characters ... to the owner's hand" perdia filtro inteiro (8 cartas + 2 gaps de engine)

Continuacao da varredura (bloco 222). OP10-047 (Koala): "[When
Attacking] You may return 1 of your "Revolutionary Army" type
Characters with a cost of 3 or more to the owner's hand: This
Character gains +3000 power during this turn." -- o custo
(`return_own_character_to_hand`) ja existia como mecanismo no
parser/engine, mas a regex so aceitava "characters to the owner's
hand" ADJACENTE, sem filtro nenhum no meio. Qualquer carta com filtro
de tipo/custo/exclusao nessa clausula perdia o CUSTO INTEIRO -- a IA
tratava a habilidade como GRATIS.

Busca global achou **8 cartas**: EB01-021, OP07-056, OP10-002,
OP10-047 (tipo+custo), OP16-045, OP16-050, ST12-001 (so custo),
OP08-047 ("other than this Character", exclusao).

**2 gaps de ENGINE no mesmo escopo** (achados ao validar, nao so
parser): (1) `_pay_costs` ignorava filter_type/cost_gte/exclude
completamente -- escolhia o pior Character de TODO o campo pra
devolver, sem checar elegibilidade; corrigido pra filtrar via
`eligible_cards` antes de escolher. (2) `return_own_character_to_hand`
NUNCA entrava na conta de `_worth_paying_optional_costs` -- a IA
sempre tratava como custo "de graca" (igual rest_self/rest_don), nunca
julgando se o sacrificio de campo compensava o efeito. Adicionado a
`_SACRIFICE_COST_TYPES` com o MESMO criterio ja usado por
ko_own_character/trash_own_character (board_value*10 <= 60).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=8 (as 8 cartas,
conferidas). `gerar_dbs.py` + `snapshot_parser.py` 0/0/0. `smoke_fast.py`:
1 teste dirigido novo com EXECUCAO real (custo pago SO com candidato
elegivel por tipo+custo; sem candidato, custo nao pago e efeito nao
dispara; julgamento de "vale a pena" aceita sacrificio barato e recusa
sacrificio caro). `smoke_test.py`: TODOS OS TESTES PASSARAM.
`smoke_test_broad.py`: 7/7 (rodado na hora, mexeu em codigo
compartilhado por toda a base: `parse_costs`, `_pay_costs`,
`_worth_paying_optional_costs`). Registro em
`parser_audits/2026-07-16_op10-047_return_own_character_filtro.json`.

Suspeitos: 290 -> 286.

## 2026-07-16 (222) - OP09-007: power_lte nunca extraido para target='leader' em parse_power_buff

Continuacao da varredura (bloco 221). OP09-007 (Heat): "Up to 1 of your
Leader with 4000 power or less gains +1000 power during this turn."
-- `power_lte` so era extraido pra `target='own_character'` (achado
16/07 anterior), nunca pra `target='leader'`. O buff aplicava
incondicionalmente ao Leader, mesmo com power muito acima de 4000.

Census: so 1 carta no banco inteiro usa esse filtro no Leader --
`isolated_after_global_scan`. **Quase causou regressao**: a primeira
tentativa reusou a MESMA regex frouxa de `own_character` (busca "with
N power or less" em qualquer lugar da janela de 90 chars), o que
contaminou OP03-016 ("K.O. up to 1 of your opponent's Characters with
8000 power or less, and your Leader gains... +3000 power") -- o "8000
power or less" pertence ao KO anterior, sem relacao com o Leader, mas
a janela generica capturou por proximidade. Pego pelo `diff_parser.py`
ANTES do commit (MUDOU inesperado em OP03-016), corrigido com regex
mais estrita (exige "your leader with N power" adjacente).

Executor tambem corrigido (mesmo padrao "calculado mas nao usado" ja
documentado): `buff_power(target='leader')` aplicava o buff
incondicionalmente, ignorando `power_lte` completamente -- agora checa
`leader.effective_power()` antes de aplicar.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1 (so OP09-007;
OP03-016 conferido SEM mudanca apos a correcao). `gerar_dbs.py` +
`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste dirigido novo com
EXECUCAO real (Leader 4000 power recebe o buff; Leader 5000 power NAO
recebe) + guarda estatica pra OP03-016. `smoke_test.py`: TODOS OS
TESTES PASSARAM. `smoke_test_broad.py`: 7/7. Registro em
`parser_audits/2026-07-16_op09-007_leader_power_lte.json`.

Suspeitos: 290 -> 290 (TOTAL nao muda -- OP09-007 continua na lista
por um "1" residual de "up to 1 of your Leader", cardinalidade
implicita de alvo unico, mesmo falso-positivo ja documentado pra
give_don/give_don_opp; so caiu do corte `--min-severity 2` pro 1,
mesma situacao ja registrada no bloco 218/219 -- checado com
`--min-severity 1` desta vez ANTES de escrever o numero, nao depois).

## 2026-07-16 (221) - EB03-060: faixa de custo "N to M" nao reconhecida em parse_look_at (busca no topo do deck)

Continuacao da varredura (bloco 220). EB03-060 (Will You Be My
Servant?): "look at 4 cards from the top of your deck; reveal up to 1
card with a cost of 2 to 8 and add it to your hand." -- `parse_look_at`
so reconhecia "cost of N or less"/"or more" separados, nunca a FAIXA
"N to M". A carta revelada podia ser de QUALQUER custo, ignorando o
filtro 2-8 por completo.

Mesma FORMA ja corrigida em 15/07 pra `parse_add_from_trash` (OP05-091,
fonte=trash) mas nunca propagada pra `parse_look_at` (fonte=topo do
deck) -- funcoes irmas, mesmo padrao textual, faltava so nesta.
Census: so EB03-060 usa a faixa com fonte=deck (as outras 2 ocorrencias,
OP05-088/OP05-091, sao fonte=trash, ja cobertas) --
`isolated_after_global_scan`.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1. `gerar_dbs.py`
+ `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste dirigido novo
com EXECUCAO real (3 cartas no topo do deck, custo 1/5/9 -- so a de
custo 5 dentro da faixa 2-8 e adicionada a mao). `smoke_test.py`:
TODOS OS TESTES PASSARAM. `smoke_test_broad.py`: 7/7. Registro em
`parser_audits/2026-07-16_eb03-060_look_at_cost_range.json`.

Suspeitos: 291 -> 290.

## 2026-07-16 (220) - OP07-024 e familia: "up to N of your [Tipo] Characters gains [Blocker]" tratado como self em vez de selecao (4 cartas)

Continuacao da varredura (bloco 219). OP07-024 (Koala): "[On Your
Opponent's Attack] You may rest this Character: Up to 1 of your
[Fish-Man] type Characters with a cost of 5 or less gains [Blocker]
during this turn." -- BUG DE COMPORTAMENTO REAL, nao so filtro
perdido: o parser tratava essa clausula como `gain_blocker` (alvo=self,
a propria Koala), mas o texto claramente seleciona OUTRO Character do
campo por tipo/custo. Como Koala se resta como CUSTO do proprio
efeito, a implementacao antiga concederia Blocker a uma carta ja
restada -- inutil, ja que rested nao pode ativar Blocker de qualquer
forma. A habilidade inteira nunca funcionava como deveria.

Busca global achou 4 cartas com a mesma FORMA ("up to N of your [Tipo]
Characters ... gains [Blocker]"): OP07-024 (filtro de custo),
OP07-103/OP15-055 (so filtro de tipo), OP12-012 (Buggy -- "type
including X" + "other than [Buggy]" de auto-exclusao + duracao "until
the end of your opponent's next End Phase"). Em OP12-012 o bug era
ainda mais serio: a versao antiga concedia Blocker PERMANENTE (sem
duration nenhuma) a SI MESMO, ignorando completamente o "other than
[Buggy]".

Fix: nova acao `select_grant_blocker` (parser + executor), mesma
familia arquitetural de `select_grant_rush_character` ja existente
pra outra keyword. `until_opp_end_phase`/`until_opp_turn_end` mapeiam
pro MESMO `blocker_this_turn` no executor -- o engine ja trata essas
duas durations como equivalentes pra `cannot_attack_until` (documentado
em `refresh_phase`, ambas resetam so no refresh do dono), evitando
introduzir um campo novo que precisaria ser replicado em ~10 pontos
que ja checam `has_blocker`/`blocker_this_turn` direto.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=4 (as 4 cartas,
conferidas). `gerar_dbs.py` + `snapshot_parser.py` 0/0/0. `smoke_fast.py`:
2 testes dirigidos novos com EXECUCAO real (OP07-024: so o Fish-Man de
custo<=5 ganha Blocker; OP12-012: exclusao da propria fonte funciona).
`smoke_test.py`: TODOS OS TESTES PASSARAM. `smoke_test_broad.py`: 7/7
(rodado na hora, mexeu em `parse_block`, compartilhada por toda a
base). Registro em
`parser_audits/2026-07-16_op07-024_select_grant_blocker.json`.

Suspeitos: 295 -> 291 (as 4 cartas saem da lista por completo).

## 2026-07-16 (219) - EB01-028: qualificador "active" e verbo "return" nao tolerados (opp_bounce_own_character + place_opp_character_bottom_deck)

Continuacao da varredura (bloco 218). EB01-028 (Gum-Gum Champion
Rifle) tinha DUAS clausulas inteiras nunca parseadas:

1. **[Counter]** "your opponent returns 1 of their ACTIVE Characters
   to the owner's hand" -- o qualificador "active" entre o possessivo
   e "characters" quebrava a regex de `opp_bounce_own_character`
   (`parse_opp_self_move_character`), que so aceitava "their
   characters" direto. Alem de reconhecer a clausula, "active" tambem
   RESTRINGE quais characters do oponente sao elegiveis -- adicionado
   `active_only`/`rested_only` como filtro real (nao so cosmetico) em
   `rules_facade`/`decision_engine.py`.
2. **[Trigger]** "Return up to 1 Character with a cost of 3 or less to
   the bottom of the owner's deck" -- `parse_place_bottom` so aceitava
   o verbo "place" pra essa remocao, nao "return" (sinonimo confirmado
   via WebSearch contra o card oficial, limitlesstcg -- o scrape do
   banco bate exato, a ambiguidade de alvo no Trigger, sem "of your
   opponent's", e genuina do card, nao erro de scrape; sem
   qualificador de posse = mira o oponente, regra ja estabelecida).

**Bug pego ANTES do commit** (nao chegou a regredir): ao adicionar
"return" como sinonimo de "place", o `.*?` sem guarda de ponto em
`parse_place_bottom` atravessava DUAS sentencas sem relacao em
EB01-029 ("return...to the owner's hand [bounce]. Then, place...bottom
of your deck [sujeito DIFERENTE, a carta REVELADA]"), fabricando uma
acao `place_own_character_bottom_deck` errada. `diff_parser.py`
acusou o MUDOU inesperado em EB01-029 -- corrigido trocando `.*?` por
`[^.]*?` nos dois pontos de `parse_place_bottom` (m_own e o loop
principal), ambos re-verificados sem regressao depois.

**Bug de engine tambem pego pelo smoke_test.py** (nao commitado com o
bug): `opp_bounce_own_character` nao estava na whitelist
`safe_extra_actions` de `_counter_event_power_plan` -- a acao nova
quebrava silenciosamente a deteccao de "Counter event com buff de
power" pra qualquer carta que tambem tivesse essa acao no mesmo bloco
Counter (so EB01-028 hoje). Corrigido adicionando a whitelist.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1 (so EB01-028;
EB01-029 conferido SEM mudanca apos o guard de ponto).
`gerar_dbs.py` + `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste
dirigido novo com EXECUCAO real (active_only bounce so o character
ATIVO mesmo sendo o mais forte no board_value; guarda estatica
confirmando EB01-029 nao fabrica a acao errada; Trigger manda so
custo<=3 pro fundo do deck do oponente). `smoke_test.py`: 1 falha REAL
encontrada (safe_extra_actions) e corrigida, depois TODOS OS TESTES
PASSARAM. `smoke_test_broad.py`: 7/7. Registro completo em
`parser_audits/2026-07-16_eb01-028_active_qualifier_e_return_sinonimo_place.json`.

Suspeitos: 296 -> 295 (EB01-028 sai da lista por completo, as duas
clausulas resolvidas).

## 2026-07-16 (218) - OP16-039: typo "cost or N or less" nao tolerado em rest_opp_character

Continuacao imediata da varredura (bloco 217). OP16-039 (Gum-Gum Twin
Jet Pistol): "rest up to 2 of your opponent's Characters with a cost
or 3 or less" -- typo do banco ("or" em vez de "of"). A mesma
tolerancia `cost (?:of|or)` ja existia (achado 16/07 anterior, OP14-119,
em `lock_opp_character_attack`) mas nao tinha sido propagada pra
`rest_opp_character`, que usa uma regex separada. `cost_lte` saia
ausente -- executor cai no default 99, restando QUALQUER Character do
oponente, nao so os de custo<=3.

Census: so 2 cartas usam esse typo no banco inteiro (OP14-119, ja
coberto; OP16-039, nao coberto) -- `isolated_after_global_scan` (mesmo
padrao textual, mecanismo diferente, so 1 carta afetada por essa
combinacao especifica).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1. `gerar_dbs.py`
+ `snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste dirigido novo
com EXECUCAO real (character de custo 3 restado, o de custo 5 fica de
fora). `smoke_test.py`: TODOS OS TESTES PASSARAM. `smoke_test_broad.py`:
7/7. Registro em
`parser_audits/2026-07-16_op16-039_rest_opp_character_typo_cost_or.json`.

Suspeitos: 296 -> 296 (nao muda o TOTAL -- OP16-039 continua na lista
por um "1" residual e NAO relacionado, de "up to 1 of your
[Monkey.D.Luffy] cards gains [Double Attack]"; o fix so removeu o "3"
de severidade, tirando a carta do corte `--min-severity 2`. Correcao
registrada aqui apos checagem: a versao original deste bloco alegava
"296 -> 295" sem re-rodar o audit tool pra confirmar -- nao fazer essa
suposicao de novo, sempre re-rodar com `--min-severity 1` pra pegar o
TOTAL real antes de escrever o numero no HANDOFF).

## 2026-07-16 (217) - OP14-091 e familia: janela de parse_play_generic cortava em pontos DENTRO de colchetes (14 cartas + 2 gaps de engine)

Retomada da varredura via `audit_parser_coverage.py --min-severity 2 --show`.
OP14-091 (Mr.2.Bon.Kurei/Bentham): "Play up to 1 Character card with a
type including "Baroque Works" and a cost of 5 or less other than
[Mr.2.Bon.Kurei.(Bentham)] from your hand or trash." -- `cost_lte`
saia sempre 99 (devia ser 5), `filter_type`/`source_alt` ausentes.

Causa raiz: `parse_play_generic()` calculava o fim da janela de busca
com `t.find('.', m.end())` -- o primeiro PONTO literal, sem ignorar
pontos DENTRO de colchetes/chaves. Nomes reais com ponto (`[Monkey.D.
Luffy]`, `[Portgas.D.Ace]`, `[Mr.2.Bon.Kurei.(Bentham)]`, `[Dr.
Hogback]` -- **300+ nomes no banco** usam esse padrao) cortavam a
janela ANTES do texto real terminar. Um caso (**OP14-110**) e mais
grave que "so faltou um filtro": a janela truncada escondia um "from
your trash" que deveria ter BLOQUEADO o `play_card` generico -- a
carta gerava uma acao DUPLICADA/bogus (jogar da mao uma carta
literalmente chamada "Trigger", carta que nunca existe -- na pratica
inofensivo, mas dado errado).

Fix generico: fim de janela agora escaneia caractere a caractere,
ignorando pontos com profundidade de colchete/chave > 0 (nao so o
primeiro '.'). Aproveitado pra trazer `parse_play_generic` (fonte=mao)
pra PARIDADE com `parse_play_from_trash` (que ja tinha isso e por
design nao sofria desse bug, ancorado em "from your trash" em vez de
ponto-fim-de-frase): suporte a `type including "X"` fora do inicio da
clausula, `and a cost of N or less` (alem de `with a cost of`),
`power_eq` (`and NNNN power` exato), e `has_trigger` (`a [Trigger]`) --
com exclusao explicita de tokens de keyword (trigger/blocker/rush/
banish/double attack) do loop que detecta `filter_name`, que antes
tratava `[Trigger]` como se fosse nome de carta (OP14-110 de novo).

**Gap de ENGINE encontrado no mesmo escopo** (mesmo padrao ja
documentado no README de `parser_audits/` pra bounce/power_eq --
"calculado mas nao usado"): `has_trigger` e `power_eq` nunca eram
repassados por `decision_engine.py` pra `eligible_cards()` nas acoes
`play_card`/`play_from_trash` -- o parser ja gravava o campo certo no
JSON, mas o executor ignorava. E `play_from_trash` tambem ignorava
`exclude` (self-exclusion), afetando 6 cartas (EB01-043, EB02-047,
OP10-082, OP11-092, OP14-110, OP16-085) mesmo sem nenhuma relacao com
o bug de janela. Corrigido: novo param `has_trigger` em
`rules_facade.eligible_cards`, repassado nos dois call sites, `exclude`
tambem repassado em `play_from_trash`.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=15 (todas as 15
mudancas conferidas manualmente contra o texto cru). `gerar_dbs.py` +
`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste dirigido novo com
EXECUCAO real cobrindo os 3 pontos do fix de engine (has_trigger
filtrando em play_card, power_eq+filter_type filtrando em play_card,
exclude barrando a copia homonima em play_from_trash) -- os 3 SO
passam porque o wiring de engine foi feito, nao so o parser.
`smoke_test.py`: TODOS OS TESTES PASSARAM. `smoke_test_broad.py`: 7/7
(rodado na hora, nao esperou 3 familias -- mexeu em codigo
compartilhado por centenas de cartas: `parse_play_generic` e
`rules_facade.eligible_cards`). Registro completo em
`parser_audits/2026-07-16_op14-091_play_generic_janela_ponto_em_colchete.json`.

Suspeitos: 299 -> 296. Nenhuma das 14 cartas tocadas aparece em deck
salvo hoje, mas o bug de janela e transversal (300+ nomes com ponto no
banco inteiro) -- outras cartas com essa mesma forma que hoje nao
disparam o audit tool (por nao ter numero "perdido" detectavel) podem
ter sido corrigidas de graca por tabela.

**Gap identificado mas NAO corrigido (fora de escopo, registrar pra
depois):** `PRB02-018`/`ST13-006` tem "play up to 1 [Nome1], [Nome2],
or/and [Nome3], with a cost of N from your hand" -- lista de 3 nomes
proprios (OR ou AND-each) da qual `parse_play_generic` so captura o
PRIMEIRO nome, silenciosamente ignorando os outros 2. Bug DIFERENTE do
de janela (nao e truncamento, e falta de suporte a lista de nomes) --
seria preciso um novo campo tipo `filter_names` (lista) + wiring no
executor pra semantica OR, e uma extensao pro caso AND-each (gerar N
steps independentes). So 2 cartas conhecidas, nenhuma usada em deck
salvo -- fica pendente, nao implementado por falta de escopo/tempo
nesta sessao (evitar meio-implementado, ver CLAUDE.md).

## 2026-07-16 (216) - FIM DE SESSAO: resumo acumulado da varredura (blocos 197-215, suspeitos 349 -> 299)

Sessao longa de varredura 1-por-1 do `audit_parser_coverage.py`,
parando aqui a pedido do usuario ("gostei, agora progredimos... quero
que salve, registre tudo pra uma nova sessao"). Nenhum trabalho em
andamento nao commitado -- git status limpo (so `.claude/` nao
versionado). 16 familias corrigidas nesta sessao (blocos 197-215),
cobrindo bem mais de 100 cartas reais. Suspeitos: **349 -> 299**.

**Achados de maior impacto (pra quem for auditar depois):**
- Bug de COMPORTAMENTO REAL (nao so parseado incompleto): buff de
  power indo pro Leader ERRADO em 11 cartas (bloco 211) -- condicao
  "if your leader..." contaminava a deteccao de alvo.
- `cost_buff_permanent` acumulava sem limite turno apos turno (bloco
  206) -- bug de ENGINE pre-existente, achado durante validacao.
- 2 regressoes pegas e REVERTIDAS antes de qualquer commit (blocos 209
  e 212) -- ver [[feedback_verificar_hipotese_contra_casos_existentes]]
  na memoria pro detalhe de como evitar isso de novo.
- Mecanica inteiramente nova: `reveal_deck_top_conditional` (bloco
  212), reutilizando o padrao ja existente de
  `reveal_opp_deck_top_choose_cost`.
- Um unico fix generico (`power_lte` em `play_card`, bloco 213) resolveu
  21 cartas de uma vez -- maior queda de suspeitos num commit so.

**Infra nova reutilizavel criada nesta sessao** (procurar antes de
reinventar): `buff_power_per_count`/`buff_cost_per_count` (escalas
dinamicas por trash/hand/DON, aceita amount_per negativo),
`reveal_deck_top_conditional`, `reveal_from_hand` (custo de revelar,
por tipo OU por power), `own_character` com `count`>1,
`chars_lte`/`chars_gte` com filtro de power/custo,
`board_chars_cost_gte_count` (contagem, distinto de
`board_has_cost_gte`), `hand_or_trash` como source combinada de
`gain_life`, `opp_chars_rested_gte` (simetrico a `chars_rested_gte`).

**Falsos-positivos ja confirmados** (nao reinvestigar): `give_don`/
`give_don_opp` sao sempre single-target -- o "1" que o audit tool
aponta como perdido e so cardinalidade implicita, nunca um bug real.

**Para retomar:** rodar `python audit_parser_coverage.py --min-severity
2 --show 15` (prioriza cartas com 2+ numeros perdidos). Memoria salva
em `project_parser_audit_progress.md` com o mesmo resumo pra
persistir entre sessoes mesmo se o HANDOFF crescer muito.

## 2026-07-16 (215) - OP16-003 e familia: custo "reveal N Character cards with X power" nunca reconhecido (6 cartas)

OP16-003 (Edward.Newgate): "You may reveal 2 Character cards with 8000
power from your hand: Give up to 1 of your opponent's Characters
-6000 power during this turn." O custo OPCIONAL de revelar (prova de
posse, nao remove nada da mao) nunca era reconhecido -- so a variante
por TIPO ja existia (`reveal_from_hand` com `filter_type`). O debuff
(as vezes bastante forte) disparava de GRACA, sem exigir as cartas na
mao. Busca global achou **6 cartas**: OP16-002, OP16-003, OP16-007,
OP16-010, OP16-011, ST30-004.

Fix: novo regex produzindo o MESMO cost type `reveal_from_hand`, com
campos novos `power_eq` (exato, texto sem qualificador) e
`card_type='CHARACTER'`. Executor estendido pra filtrar tambem por
esses 2 campos, combinaveis com o `filter_type` ja existente.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=6.
`gerar_dbs.py`+`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste
dirigido novo com EXECUCAO real (sem Character do power certo na mao,
efeito NAO dispara; com ele, dispara E a carta continua na mao).
`smoke_test.py`: TODOS OS TESTES PASSARAM. `smoke_test_broad.py` NAO
rodado (fix isolado numa familia de custo).

Suspeitos: 304 -> 299. Registro completo em
`parser_audits/2026-07-16_reveal_from_hand_power.json`.

## 2026-07-16 (214) - OP08-018: "Up to N of your Characters gain +X power" com N>1 so escolhia 1

Fix pequeno e isolado. OP08-018: "Up to 3 of your Characters gain
+1000 power during this turn." -- so 1 Character ganhava o buff, mesmo
com N=3 no texto. Nem o parser extraia `count` pro target
`own_character` (so `opp_character` ja tinha essa extracao), nem o
executor respeitava um count>1 (sempre escolhia 1 via
`choose_highest_board_value`, sem loop). Census: 13 cartas usam esse
target, mas so OP08-018 usa N>1 -- `isolated_after_global_scan`.

Fix: `count_own` extraido do contexto (mesmo padrao ja usado pro
`opp_character`); executor faz loop de ate `count` candidatos
(escolhendo o de maior board_value a cada iteracao).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1.
`gerar_dbs.py`+`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste
dirigido novo com EXECUCAO real (exatamente 3 dos 5 Characters em
campo ganham o buff, os mais fortes; o mais fraco fica de fora).
`smoke_test.py`: TODOS OS TESTES PASSARAM. `smoke_test_broad.py` NAO
rodado (fix isolado, 1 carta).

Suspeitos: 304 -> 304 (OP08-018 continua na lista por um "1" residual
de "give up to 1 of your opponent's Characters 2000 power" --
cardinalidade implicita ja correta, mesmo padrao de falso-positivo ja
documentado em give_don/give_don_opp).

## 2026-07-16 (213) - OP15-097/EB04-045/EB02-022: 4 bugs relacionados + play_card power_lte generalizado (25 cartas)

Continuacao da varredura, batch de 4 achados relacionados:

1. **OP15-097**: bloco `[Main]` inteiro ausente -- "with a BASE cost of
   N or less cannot attack" nao tolerava a palavra "base" (mesma
   familia transversal ja documentada nesta sessao). Fix: "base"
   tolerado como opcional.
2. **EB04-045**: "If there are 2 or more Characters with a cost of 8 or
   more" -- condicao de CONTAGEM (nao so existencia de 1) nunca
   implementada. Nova condicao `board_chars_cost_gte_count` =
   `{count_gte, cost_gte}`, ambos os lados do campo.
3. **EB02-022/OP10-010**: "if you have N or less Characters with M
   power or more" -- `chars_lte` tinha um lookahead negativo `(?!
   with)` que EXCLUIA de proposito essa variante com filtro. Novo
   `chars_lte_power_filter`.
4. **play_card (25 cartas!)**: "play up to N [Tipo] Character card with
   M power or less [and no base effect] from your hand" -- o parser
   NUNCA extraia `power_lte`/`filter_no_effect`, mesmo esses campos ja
   sendo suportados pelo EXECUTOR (usado por `gain_life`/source=trash)
   -- so faltava a extracao + o repasse no executor de `play_card`
   GRUPO 2. Census inicial achou so 4 cartas ("no base effect"), mas o
   fix generico (`power_lte` sozinho, sem exigir "no base effect")
   revelou **25 cartas reais** no total.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=26 (todas
conferidas). `gerar_dbs.py`+`snapshot_parser.py` 0/0/0. `smoke_fast.py`:
1 teste dirigido novo com EXECUCAO real (EB04-045 disparando/nao-
disparando conforme contagem de custo>=8 em AMBOS os lados; EB02-022
jogando SO o Character dentro do filtro power<=6000). `smoke_test.py`:
TODOS OS TESTES PASSARAM. **`smoke_test_broad.py`: 7/7** -- rodado por
seguranca extra (mudanca em `parse_play_generic`, funcao central usada
por centenas de cartas).

Suspeitos: 325 -> 304 (queda grande, confirma o alcance real do fix de
`power_lte`). Registro completo em
`parser_audits/2026-07-16_play_card_power_lte_e_chars_lte_filter.json`.

## 2026-07-16 (212) - OP04-011 e familia: "Reveal 1 card... If [condicao]..." nunca reconhecido (mecanica nova, 9 cartas)

Continuacao da varredura. OP04-011 (Nami): "Reveal 1 card from the top
of your deck. If the revealed card is a Character card with 6000 power
or more, this Character gains +3000 power during this turn. Then,
place the revealed card at the bottom of your deck." O buff disparava
SEMPRE, ignorando o que foi revelado -- mecanica ENTEIRAMENTE NOVA
(nao existia infra pra "revelar do proprio deck, checar propriedade,
condicionar outro efeito"). Busca global achou 13 cartas: 3 usam uma
mecanica DIFERENTE ja existente e correta (`play_from_deck`, "you may
play that card" -- OP01-060/OP07-048/OP12-058, excluidas via guard),
1 (EB01-029) tem o efeito nao reconhecido por nenhum parser ainda
(fallback seguro: nao aplica fix parcial, fica pendente), e **9**
tinham a condicao inteira ausente: OP04-011, OP14-044, OP15-065,
ST17-001, ST22-003, ST22-006, ST22-007, ST22-012, ST22-016.

Fix: novo bloco em `parse_block` seguindo o MESMO padrao ja usado por
`reveal_opp_deck_top_choose_cost` (precedente existente, nested
`on_match_steps`) -- extrai o filtro da carta revelada
(`revealed_card_type`/`cost_lte`/`cost_gte`/`power_gte`) e reusa
`parse_block` recursivamente pro efeito. Se condicao OU efeito nao
forem reconhecidos, retorna vazio (comportamento antigo prevalece,
nunca aplica fix quebrado). Novo executor `reveal_deck_top_conditional`
segue o mesmo padrao do precedente. Regra oficial: carta revelada fica
no TOPO por padrao, so vai pro fundo quando o texto pede
explicitamente ("Then, place the revealed card at the bottom").

**Regressao pega e revertida ANTES do commit:** o regex generico
inicial capturou errado o texto complexo de OP12-058 (multi-clausula,
"you may play that card. If you do, ..."), perdendo o `play_from_deck`
+ `gain_rush` corretos. Corrigido com guard explicito.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=9 (incluindo
confirmacao de que OP12-058 NAO mudou). `gerar_dbs.py`+
`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste dirigido novo com
EXECUCAO real (buff dispara/nao-dispara conforme a carta revelada,
carta vai pro fundo ou fica no topo conforme `return_to`).
`smoke_test.py`: TODOS OS TESTES PASSARAM. **`smoke_test_broad.py`:
7/7** -- rodado por seguranca extra (mecanica nova + mudanca em
`parse_block`, funcao central do parser inteiro).

Suspeitos: 326 -> 325. Registro completo em
`parser_audits/2026-07-16_reveal_deck_top_conditional.json`. Pendencia
registrada: EB01-029 ("return up to 1 of your characters to the
owner's hand" nao reconhecido por nenhum parser -- precisa de fix
separado antes de fechar essa carta especifica).

## 2026-07-16 (211) - EB04-048 e familia: buff de power ia pro Leader ERRADO (condicao contaminava alvo)

Retomando a varredura padrao 1-por-1 (fila de suspeitos maiores
concluida no bloco 210). Investigando EB04-048 (Rob Lucci) achei um bug
mais serio que o esperado: "If your Leader's type includes 'CP', this
Character gains +1000 power and -2 cost for every 5 cards in your
trash." O buff de POWER (que ja aparecia no parseado) estava indo pro
`target='leader'` -- ERRADO, deveria ser `'self'` (a propria carta). A
condicao ("your leader's type includes") contaminava a deteccao de
alvo, que checava 'your leader' em QUALQUER lugar da janela de 90
chars ANTES de checar 'this character'/'this card' (adjacente ao
verbo "gains", o sujeito real).

Busca global (regex "if your leader ... this character gains") achou
**11 cartas** com esse EXATO bug -- todas confirmadas via execucao
real aplicando o buff no `me.leader.power_buff` errado em vez do
Character: EB01-027, EB04-048, OP01-083, OP06-088, OP09-086, OP11-112,
OP15-051, OP16-068, PRB02-001, ST16-003, ST27-001. Esse e um bug de
COMPORTAMENTO DE JOGO real (nao so cosmetico no JSON) -- o buff
beneficiava o lado errado do tabuleiro.

Fix: novo check de ADJACENCIA ("this character/card" IMEDIATAMENTE
antes de "gains") com prioridade sobre a presenca solta de "your
leader", em `target_from_context` (variante dinamica) e no bloco
inline (buff estatico). Guard `(?<!other than )` protege contra
falso-positivo em "other than this card gains" (ST01-005, clausula de
EXCLUSAO de alvo, nao o alvo em si -- confirmado que continua
`leader_or_character`, nao afetado).

**Bug adjacente (mesma carta, mesma investigacao):** "and -2 cost for
every 5 cards in your trash" nunca era reconhecido -- a clausula "and
-2 cost" entre "power" e "for every" quebrava o regex dinamico
existente (que exigia "power" direto seguido de "for every"). Novo
regex combinado captura "gains +N power and [sinal]M cost for every K
cards" numa unica passada, produzindo `buff_power_per_count` +
`buff_cost_per_count` com o MESMO divisor. `buff_cost_per_count`
tambem ganhou suporte a `amount_per` NEGATIVO (guard trocado de
`amount<=0` pra `amount==0` -- antes tratava reducao de custo como
"sem efeito").

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=11 (todas
conferidas, incluindo confirmacao de que ST01-005 NAO mudou).
`gerar_dbs.py`+`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste
dirigido novo com EXECUCAO real (power_buff aplicando no Character
certo, nao no Leader; EB04-048 ganhando +2000 power E -4 cost
simultaneamente). `smoke_test.py`: TODOS OS TESTES PASSARAM.
**`smoke_test_broad.py`: 7/7** -- rodado por seguranca extra
(`target_from_context` e uma funcao COMPARTILHADA por todo
`parse_power_buff`, nao so pelas 11 cartas achadas).

Suspeitos: 326 -> 326 (a maioria dessas 11 cartas nao tinha numero
perdido -- o buff aplicava com o VALOR certo, so no ALVO errado,
invisivel ao audit numerico; so EB04-048 tinha numero visivelmente
ausente, e mesmo essa permanece na lista por um detalhe de extracao do
audit tool que nao reconhece "-2" como contendo o digito "2").
Registro completo em
`parser_audits/2026-07-16_leader_condicao_contamina_alvo_self.json`.

## 2026-07-16 (210) - ST13-003 Luffy: gain_life com source='hand' ignorava filtro em 2 camadas (parser + engine)

Ultimo item da fila de suspeitos maiores desta sessao (blocos 207-210).
ST13-003: "[DON!! x2][Activate: Main][Once Per Turn]You may trash 1
card from your hand: If you have 0 Life cards, add up to 2 Character
cards with a cost of 5 from your hand or trash to the top of your Life
cards face-up." Bloco inteiro ausente -- causa raiz: um regex especifico
JA ESCRITO numa sessao anterior (comentario citava "ST13-003") tinha um
char-budget fixo (`.{0,30}?`) pequeno demais pro filtro real desta
carta (33 chars), nunca casando.

Investigando achei que o bug e MAIS PROFUNDO, em 2 camadas: (a) o
parser so extraia filter_type/cost quando `source=='trash'`, nunca
quando `source=='hand'`; (b) MESMO quando o filtro existisse no step,
o EXECUTOR de `gain_life` com `source=='hand'` fazia `hand.pop(0)` --
sempre a 1a carta da mao, ignorando QUALQUER filtro. Busca global
achou **6 cartas** com esse padrao ("add up to N [Tipo] type Character
card [with a cost of X] from your hand [or trash] to the top of your
Life cards face-up"): EB04-060, OP08-116, OP09-104, OP10-103, OP10-107
(+`cost_eq` exato, sem "or less"), ST13-003 (fonte COMBINADA
`hand_or_trash` nova + count=2).

Apresentado ao usuario ANTES de codar (escopo ampliado de "so destravar
ST13-003" pra "consertar as 2 camadas nas 6 cartas") -- confirmado.

**Fix:** regex de ST13-003 reescrito (extrai filter_type/cost_eq/
cost_lte explicitamente, fonte vira `hand_or_trash`); bloco generico de
`gain_life` estendido pra processar `source=='hand'` com os MESMOS
filtros de `source=='trash'`; executor de `gain_life` reescrito
(`source=='hand'` usa `eligible_cards()`+`choose_highest_board_value()`
em vez de `pop(0)`; nova branch `source=='hand_or_trash'` concatena
candidatos das 2 zonas).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=6 (todas
conferidas). `gerar_dbs.py`+`snapshot_parser.py` 0/0/0. `smoke_fast.py`:
1 teste dirigido novo com EXECUCAO real (SO o Character de custo EXATO
5 vai pra vida, nao o mais perto do inicio da mao; ST13-003 alcanca um
candidato que so existe no TRASH via a fonte combinada). `smoke_test.py`:
TODOS OS TESTES PASSARAM. **`smoke_test_broad.py`: 7/7** -- rodado por
seguranca extra (executor compartilhado de `gain_life`, usado por
dezenas de cartas alem desta familia).

Suspeitos: 328 -> 326. Registro completo em
`parser_audits/2026-07-16_st13-003_gain_life_hand_filtro.json`. Fila de
suspeitos maiores (207-210) concluida nesta sessao; proximo passo:
retomar a varredura padrao 1-por-1 pelos 326 restantes numa proxima
sessao, ou avaliar se e hora de voltar ao PLANO_AVALIACAO_E_BUSCA.md
(Fase 1, engine puro) conforme o plano de longo prazo do usuario.

## 2026-07-16 (209) - OP10-058 Rebecca: par reveal-e-joga ausente (+ tentativa revertida de split_if_then)

Continuacao da lista de suspeitos (bloco 208). OP10-058: "...Then,
reveal up to 2 \"Dressrosa\" type Character cards with a cost of 7 or
less other than [Rebecca] from your hand. Play 1 of the revealed
cards and play the other card rested if it has a cost of 4 or less."
Metade da habilidade [On Play] estava ausente. Nova funcao
`parse_reveal_hand_play_pair` decompoe em 2 `play_card` sequenciais
(reaproveita 100% a infra GRUPO 2 ja existente -- cost_lte/filter_type/
exclude/enters_rested). Interpretacao de "if it has a cost of 4 or
less" CONFIRMADA com o usuario antes de codar: condiciona a ACAO
INTEIRA (joga E fica restado) -- sem candidato custo<=4 na mao apos a
1a jogada, a 2a simplesmente nao acontece.

**Quase-regressao evitada (registrada pra ninguem repetir):** tentei
tambem separar a condicao `board_has_cost:[8]` do bloco pra cobrir SO
o draw (achando que "Then, [B]" sem "if" proprio seria sempre
incondicional). Implementei `split_if_then` generico e o
`diff_parser.py` mostrou **35 cartas afetadas**. Comparando manualmente
varias (ex: EB03-003 "If Leader e Uta, draw 2. Then, play up to 1
Character card...") contra o padrao ja estabelecido no banco, ficou
claro que a hipotese estava ERRADA: "Then, B" sem "if" proprio SEMPRE
compartilha a condicao de A nessas 35 cartas, nunca e um efeito solto
incondicional. **REVERTIDO por completo** antes de qualquer
`gerar_dbs.py`/commit -- nenhuma das 35 foi alterada. `board_has_cost:
[8]` continua cobrindo os 3 steps de OP10-058 (draw + 2 plays),
consistente com o resto do banco.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1 (so
OP10-058, apos o revert completo). `gerar_dbs.py`+`snapshot_parser.py`
0/0/0. `smoke_fast.py`: 1 teste dirigido novo com EXECUCAO real (os 2
Dressrosa saem da mao e entram em campo, o de custo<=4 entra RESTADO,
draw dispara junto). `smoke_test.py`: TODOS OS TESTES PASSARAM.
**`smoke_test_broad.py`: 7/7** -- rodado por seguranca extra (a
investigacao revertida mexeu no dispatcher compartilhado antes de ser
desfeita).

Suspeitos: 328 -> 328 (OP10-058 continua na lista, mas agora so pelo
residuo benigno do "2" de "reveal up to 2" nao aparecer literalmente
no JSON -- os 2 steps count:1 separados representam a MESMA semantica,
nao e mais um gap real). Registro completo em
`parser_audits/2026-07-16_op10-058_reveal_play_pair.json`. Proximo:
ST13-003 Luffy (combo DON!!x2 inteiro ausente).

## 2026-07-16 (208) - OP04-094: habilidade [Main] inteira ausente (construcao "Choose... and K.O. it" invertida)

Proxima familia da lista de suspeitos maiores (apontada no bloco 207).
OP04-094 (Trueno Bastardo): "[Main] Choose up to 1 of your opponent's
Characters with a cost of 4 or less and K.O. it. If you have 15 or
more cards in your trash, choose up to 1 of your opponent's Characters
with a cost of 6 or less instead of a Character with a cost of 4 or
less." A habilidade [Main] INTEIRA sumia do parseado -- so o [Trigger]
separado sobrevivia. Causa: `parse_ko` so reconhece "VERBO up to N...";
esta carta usa a ordem INVERTIDA "Choose up to N ... and K.O./trash
it" (escolhe primeiro, verbo no final), forma nunca vista antes.

Busca global achou so esta carta (`isolated_after_global_scan`), mas a
forma ficou generalizada mesmo assim (N alvos, filtro de tipo
opcional, K.O. OU trash). Tambem cobre o UPGRADE CONDICIONAL ("if you
have M+ cards in your trash, ... cost Y or less INSTEAD OF ... cost
X or less") como 2 steps mutuamente exclusivos na mesma lista: base
com `conditions: {trash_lte: M-1}`, upgrade com `conditions: {trash_gte:
M}` -- nunca os 2 batem ao mesmo tempo. Nova condicao `trash_lte`
(simetrica a `trash_gte` ja existente) em `_check_conditions` e
`_effect_conditions_met`.

**Bug adjacente pego na validacao:** o scan generico de condicoes de
BLOCO (`parse_conditions(block)`) tambem casava a MESMA clausula "if
you have 15 or more cards in your trash" e aplicava como condicao do
bloco INTEIRO -- isso contradizia o step 'base' recem-criado
(`trash_lte: 14`), tornando-o INALCANCAVEL (bloco exigia trash>=15 E
step exigia trash<=14, contradicao logica). Corrigido com lookahead
negativo especifico na regex generica de `trash_gte`, excluindo a
clausula de upgrade (ja consumida por inteiro dentro de `parse_ko`).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1 (conferida
manualmente que o bloco `[Main]` nao tem `conditions` vazado no nivel
do bloco). `gerar_dbs.py`+`snapshot_parser.py` 0/0/0. `smoke_fast.py`:
1 teste dirigido novo com EXECUCAO real (trash<15 so alcanca o alvo
custo<=4, trash>=15 tambem alcanca o alvo custo 6). `smoke_test.py`:
TODOS OS TESTES PASSARAM. `smoke_test_broad.py` NAO rodado (fix
isolado, sem tocar codigo compartilhado).

Registro completo em
`parser_audits/2026-07-16_op04-094_choose_and_ko_it.json`. Suspeitos:
329 -> 328. Proximos candidatos: OP10-058 Rebecca (clausula de
reveal-e-jogar ausente), ST13-003 Luffy (combo DON!!x2 inteiro
ausente).

## 2026-07-16 (207) - ST24-004 Law & Bepo: opp_chars_rested_gte nova (simetrica a chars_rested_gte)

Continuacao da varredura 1-por-1 (proxima familia real da lista de
suspeitos por audit_parser_coverage.py --show). Antes de escolher esta,
revisei os 2 suspeitos de MAIOR uso real (OP15-008 Krieg 4x, OP06-022
Yamato 2x) e confirmei que sao FALSOS POSITIVOS: o numero "1" que o
audit tool marca como perdido e so "to 1 of your Characters",
cardinalidade ja implicita na acao give_don/give_don_opp (sempre
single-target, sem campo pra guardar esse numero) -- revisado o
executor, confirmado, nenhum fix necessario.

ST24-004: "...if your opponent has 2 or more rested Characters, your
Leader gains +2000 power..." -- condicao inteira ausente (buff
disparava sempre). `chars_rested_gte` (proprio lado) ja existia, mas
sem equivalente pro lado do OPONENTE. Busca global achou **2 cartas**:
ST24-004, OP01-032 (Ashura Doji, mesma condicao). Nova condicao
`opp_chars_rested_gte`, mesmo padrao de `chars_rested_gte` em
`_check_conditions`, contando `opp.field_chars` rested.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=2. `gerar_dbs.py`
+`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste dirigido novo com
EXECUCAO real (Ashura Doji dispara/nao-dispara conforme campo do
oponente ter 2+ Characters rested). `smoke_test.py`: TODOS OS TESTES
PASSARAM. `smoke_test_broad.py` NAO rodado (fix pequeno e isolado,
condicao nova sem tocar codigo compartilhado -- diferente do bloco
206, que mexeu em `apply_your_turn_buffs`).

Suspeitos: 331 -> 329. Proximos candidatos maiores na fila (ainda nao
investigados a fundo): OP04-094 (habilidade `[Main]` INTEIRA ausente do
parseado -- "Choose up to 1 ... and K.O. it" com limiar dinamico por
trash>=15, so o Trigger sobrevive), OP10-058 Rebecca (clausula de
reveal-e-jogar ausente), ST13-003 Luffy (combo DON!!x2 inteiro
ausente).

## 2026-07-16 (206) - ST25-002 Cabaji: 3 bugs (cost-buff perdido, "and you have" ausente, acumulo em cost_buff_permanent)

Investigando ST25-002/ST25-005 (proximo item da lista de "base cost"),
achei 2 bugs de parser e, validando, um 3o de ENGINE:

**Bug A -- "gains [Keyword] and +N cost" perdia o buff de custo
inteiro.** "this Character gains [Blocker] and +1 cost" -- so o
Blocker sobrevivia, o "+1 cost" nunca casava (a regex exigia o
sinal+numero LOGO apos "gains", e aqui vem "[Blocker] and " no meio).
8 cartas: OP12-087, OP12-089, OP12-100, P-105, PRB02-015, ST25-002,
ST25-005, e **ST27-004** (variante dinamica -- "+1 cost for every 4
cards in your trash", novo action `buff_cost_per_count`, mesma
semantica de `buff_power_per_count` pro campo `cost_buff`).

**Bug B -- condicoes "and you have X" (nao so "if you have X").**
Varias regexes de condicao so aceitavam a ancora "if", nunca "and"
(quando a condicao vem encadeada apos outra com "and"). Busca ampla
por "and you have" achou 23 ocorrencias; a maioria ja tolerava "and"
(sessoes anteriores). Gaps reais: `hand_lte`/`hand_gte` (4 cartas:
EB02-026, OP06-069, OP14-059, ST25-005), `has_don_attached` (2:
OP13-072, OP13-075), `chars_rested_gte` (2: OP09-039, OP09-041). A
mesma varredura achou **3 condicoes inteiramente novas**: `no_char_
power_gte` (negacao de other_char_power_gte, 1 carta: EB03-004),
`has_named_character` (presenca simples por nome, 3 cartas: OP02-031,
OP07-030, OP08-109), `own_rested_cards_gte` (conta TUDO rested --
DON+Characters+Leader+Stage --, 3 cartas: ST16-003, OP06-038,
OP12-118, as 2 ultimas achadas de brinde com "if" direto).

**Bug C (achado na validacao, NAO era o objetivo original) -- `cost_
buff_permanent` acumulava sem limite.** Confirmado com script isolado:
5 chamadas seguidas de `apply_your_turn_buffs()` no mesmo Card levaram
`cost_buff_permanent` de 1 a 5, `effective_cost()` subindo turno apos
turno sem teto. Bug PRE-EXISTENTE (o campo/mecanismo ja existia antes
desta sessao, usado por ex. ST14-017) -- o Bug A so tornou 8 cartas a
mais alcancaveis por esse caminho (antes nem parseavam, entao nunca
disparavam `_execute_step`). Apresentado ao usuario antes de corrigir
(fora do escopo confirmado originalmente) -- autorizado a corrigir
junto. Fix: `apply_your_turn_buffs()` agora zera `cost_buff_permanent`
junto com `power_buff`/`cost_buff` no INICIO da recalculacao (a funcao
ja re-deriva o valor do zero a cada chamada, "permanent" so precisa
sobreviver ao `reset_your_turn_buffs()` de FIM de turno, nao acumular
para sempre).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=23 (todas
conferidas). `gerar_dbs.py`+`snapshot_parser.py` 0/0/0. `smoke_fast.py`:
2 testes dirigidos novos com EXECUCAO real, incluindo confirmacao de
que `cost_buff_permanent` NAO acumula apos 4 chamadas seguidas de
`apply_your_turn_buffs()`. `smoke_test.py`: TODOS OS TESTES PASSARAM.
**`smoke_test_broad.py`: 7/7** -- rodado FORA do ciclo normal de "a
cada 3 familias" porque o Bug C mexe num loop compartilhado por TODA a
base, risco maior que um fix isolado de parser.

Registro completo em
`parser_audits/2026-07-16_st25-002_cost_buff_and_you_have.json`.
Suspeitos: 343 -> 331.

## 2026-07-16 (205) - OP15-002 Lucy: rastreamento "Event ativado neste turno" nunca existiu (fecha o lote de 3)

3a e ultima familia do lote (ver pacing no bloco 203 -- smoke_test_broad.py
rodado agora, ao final das 3, nao a cada uma). OP15-002 (Lucy):
"[Activate: Main] [Once Per Turn] If you have activated an Event with a
base cost of 3 or more during this turn, draw 1 card." Nao era falha de
regex -- o CONCEITO "evento ativado NESTE turno, com seu custo" nao
existia em nenhum lugar do engine (distinto de `events_in_trash_gte`,
que so conta quantidade acumulada no trash sem checar QUANDO nem
custo). O draw disparava sempre.

Novo campo `GameState.events_activated_costs_this_turn` (lista de
custos), resetado em `refresh_phase()` (mesmo ponto das outras
auto-restricoes "this turn") e populado nos 2 pontos onde um EVENT sai
da mao pro trash (`_play_card`, Main Phase normal, e `_put_into_play`,
caminho de efeito `play_card`). Nova condicao
`event_activated_cost_gte_this_turn` em `_check_conditions` e
`_effect_conditions_met`. Busca global achou so esta 1 carta
(`isolated_after_global_scan`).

**Achado en passant, NAO corrigido (fora de escopo):** a 1a clausula
de OP15-002 ("trash any number of Event or Stage cards..., gains
+1000 power for every card trashed") e uma mecanica de buff
PROPORCIONAL ao numero trashado nesta ativacao -- hoje simplificada
pra +1000 fixo, ignorando a escala. Nao tem numero perdido (nao e a
causa do suspeito), registrado em
`parser_audits/2026-07-16_lucy_event_activated_cost_gte_this_turn.json`
pra retomar se aparecer de novo.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1.
`gerar_dbs.py`+`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste
dirigido novo com EXECUCAO real (4 cenarios: sem Event, Event abaixo
do limiar, Event no limiar, reset via refresh_phase). `smoke_test.py`:
TODOS OS TESTES PASSARAM. **`smoke_test_broad.py`: 7/7 partidas
aleatorias sem excecao** (fecha o lote de 3 familias -- bloco 203,
204, 205).

Suspeitos: 344 -> 343. Lote de 3 familias concluido (203-205, total 18
cartas cobertas: 16 da familia OP12-102 + 1 da OP14-034 + 1 da
OP15-002). Proximo: ST25-002/ST25-005 (mesma causa compartilhada,
`chars_gte_cost_filter` -- precisa reverificar
`audit_parser_coverage.py --code ST25-002` antes de assumir que ainda
esta quebrada, ja que o fix de `chars_gte_cost_filter`
base/original-opcional do bloco 202 pode ja ter resolvido).

## 2026-07-16 (204) - OP14-034 Luffy: cor intercalada quebrava o fix all_allies+filter_type de novo

2a familia do lote de 3 (smoke_test_broad.py deferido pro fim da 3a,
ver bloco 203). OP14-034: "All of your green {Straw Hat Crew} type
Characters with a base cost of 4 or more gain +1000 power." O fix
anterior (bloco 203, mesma sessao) ja cobria tipo intercalado em "all
of your [Tipo] type Characters", mas exigia o tipo LOGO APOS "all of
your" -- aqui existe uma palavra de COR ("green") no meio, quebrando o
match pela MESMA raiz (literal rigido demais). `parse_power_buff`
ganhou tolerancia a cor opcional entre "all of your" e o tipo, com
`filter_color` extraido separado de `filter_type`; executor do target
`all_allies` ganhou aplicacao de `filter_color`.

Busca global (cor+tipo intercalados) achou mais 2 cartas com a mesma
FORMA textual, mas em acoes diferentes de `buff_power` (fora do
escopo deste fix): EB04-057 (`immunity`) e ST14-017 (`buff_cost`) --
nenhuma das duas aparece como suspeita no audit tool hoje, registradas
em `parser_audits/2026-07-16_op14-034_all_allies_filter_color.json`
como pendencia POSSIVEL pra quando alguem tocar em
`parse_immunity`/`parse_cost_buff`.

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=1 (OP14-034).
`gerar_dbs.py`+`snapshot_parser.py` 0/0/0. `smoke_fast.py`: 1 teste
dirigido novo com EXECUCAO real (3 filtros simultaneos: tipo, cor,
custo). `smoke_test.py`: TODOS OS TESTES PASSARAM.
`smoke_test_broad.py`: **DEFERIDO** (2a de 3 familias do lote).

Suspeitos: 345 -> 344. Proxima: OP15-002 (3a e ultima familia do
lote -- smoke_test_broad.py roda ao final dela).

## 2026-07-16 (203) - OP12-102 Shirahoshi: 3 bugs independentes na mesma carta (16 cartas no total)

Primeira familia do novo lote de 3 (pacing: usuario pediu pra rodar
`smoke_test_broad.py` so a cada 3 familias, nao mais a cada 1 --
"sim corta o smoke para cade 3 famlias"). OP12-102 tinha 3 bugs
INDEPENDENTES, cada um generalizado por busca global antes do fix:

**Bug 1 (custo de substituicao):** "you may turn 1 card from the top of
your Life cards face-up instead" nunca era reconhecido em
`_parse_substitute_cost` -- a clausula inteira "If your Character with
a base cost of 6 or less would be removed... you may [X] instead" caia
num fallback generico (bare `turn_life_face_up`, sem `cost_lte:6`, fora
da estrutura `substitute_removal`). Busca global: **3 cartas**
(OP12-102, OP13-109, ST29-008). Novo branch no executor
`_pay_substitute_cost` (vira carta(s) do topo da vida face-up sem
remove-la da zona).

**Bug 2 (condicao "no other" nunca implementada):** "If you have no
other [Shirahoshi] with a base cost of 2" -- nao era falha de regex, o
TIPO de condicao (auto-exclusao de copias nomeadas no proprio campo)
nao existia em NENHUM dos 3 checadores. O efeito guardado disparava
sempre. Busca global: **7 cartas** (EB01-012, EB02-018, EB04-031,
OP07-060, OP08-074, OP12-102, OP15-080) -- 2 delas (EB02-018,
OP08-074) sao gaps INVISIVEIS ao `audit_parser_coverage.py` (a
condicao ausente nao tem numero associado). Nova condicao
`no_other_named` (+ `no_other_named_cost_eq` opcional), adicionada aos
3 checadores (`_check_conditions`, `_effect_conditions_met`,
`_immunity_conds_met`). De brinde: `other_char_power_gte` ganhou uma
variante de redacao ("[Nome] with N power or more on your field") que
resolveu a clausula IRMA de OP15-080 sem nenhum codigo novo de engine.

**Bug 3 (buff de tipo cai em self):** "all of your \"Neptunian\" type
Characters gain +2000 power" caia no fallback errado `target=self`
porque o literal antigo `'all of your characters'` nunca casava com um
nome de tipo intercalado no meio. Census inicial achou 2 cartas
(OP12-102, ST05-001), mas o FIX revelou **+5 cartas reais** que
dependiam do mesmo literal quebrado (EB01-024, EB03-041 com sub-filtro
`cost_lte`, EB03-052, OP04-012 com `exclude_self`, OP08-020,
OP11-044) -- **7 cartas no total**. `parse_power_buff` ganhou deteccao
de `all of your [Tipo] type Character(s)` (aceita `{}`/`[]`/`""`)
ANTES do literal antigo, com sub-filtros de custo e exclusao propria.
Executor do target `all_allies`/`all_allies_and_leader` ganhou
aplicacao de `filter_type`/`cost_lte`/`cost_gte`/`exclude_self` (antes
buffava TODO `field_chars` incondicionalmente).

**Validado:** `diff_parser.py` GANHOU=0/PERDEU=0/MUDOU=17 (todas
conferidas manualmente contra `card_text`). `gerar_dbs.py` +
`snapshot_parser.py` 0/0/0 apos regenerar. `smoke_fast.py`: 3 testes
dirigidos novos com EXECUCAO real (substituicao via
`try_any_substitute`, condicao `no_other_named` ligando/desligando o
buff conforme presenca de outra copia, Shanks buffando so os
Characters FILM). `smoke_test.py`: suite ampla, TODOS OS TESTES
PASSARAM. `smoke_test_broad.py`: **DEFERIDO** para o fim da 3a familia
do lote (ver pacing acima) -- proximas: OP14-034, OP15-002.

Registro completo em
`parser_audits/2026-07-16_shirahoshi_no_other_named_e_all_allies_filter_type.json`.
Suspeitos: 349 -> 345 (so OP12-102 tinha numero suspeito visivel ao
audit tool; os outros 15 cartas fechadas nesta familia eram gaps
invisiveis ao audit numerico, achados so por busca textual direta).

## 2026-07-16 (202) - OP12-081 Koala: 2 triggers em PROSA (sem tag) nunca reconhecidos (2 cartas)

Continuacao da varredura 1-por-1. OP12-081 e a primeira carta desta
sessao com trigger em PROSA, sem NENHUMA tag formal ("[When Attacking]"/
"[Opponent's Turn]"): "When this Leader attacks your opponent's Leader,
if you have 2 or more Characters with a cost of 8 or more, draw 1
card." e "[Once Per Turn] This effect can be activated when your
opponent plays a Character ..., Your opponent adds 1 card from the top
of their Life cards to their hand." O parser so reconhecia triggers via
tag `[...]` explicita -- as duas clausulas caiam num fallback generico
`passive`, com a condicao de custo faltando e a 2a clausula ausente.

**Trigger 1 (when_attacking sem tag):** `_execute_attack` ja dispara
`when_attacking` corretamente pro LIDER (attacker pode ser `p.leader`)
-- nao era mecanica nova, so faltava o parser aceitar "when this leader
attacks your opponent's leader" como sinonimo da tag. Novo entry em
`trigger_patterns`.

**Trigger 2 (opp_turn aproximado):** "this effect can be activated when
your opponent plays a Character" -- MESMA aproximacao ja usada em
OP04-024 (o engine nao rastreia o evento exato "personagem jogado", so
o turno do oponente). A condicao OR complexa do texto (custo base>=8 OU
jogado via efeito de outra carta) NAO e modelada com precisao -- mesma
limitacao documentada do precedente, nao um novo gap.

**2 bugs adjacentes corrigidos junto:** `chars_gte_cost_filter` exigia
"base"/"original" antes de "cost of" (OP12-081 usa so "cost of", sem
qualificador); `opp_life_to_hand` so aceitava "from their life area",
nao "from the top of their Life cards" (fechou tambem **OP13-108**,
achado no censo).

**Bug pego na validacao:** o novo padrao `when_attacking` (sem
"[Once Per Turn]" reconhecida como delimitador de parada) engolia a
CLAUSULA SEGUINTE inteira, duplicando `opp_life_to_hand` nos dois
triggers. Corrigido com `LOOKAHEAD_DELIM_OU_ONCE` dedicado.

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=2 (confirmadas contra
`card_text`, verificado manualmente que nao ha duplicacao de steps
entre os 2 triggers apos o fix do lookahead). 1 teste dirigido novo com
EXECUCAO real (`test_koala_leader_attack_leader_e_opp_plays_character`):
confirma o draw disparando de verdade via `execute()` com 2+ Characters
de custo>=8. `smoke_fast.py` (130 checks) verde, `smoke_test.py` amplo
verde, `smoke_test_broad.py` **7/7**. Registro:
`parser_audits/2026-07-16_koala_leader_attack_e_opp_plays_char.json`
(`resolution_scope: global`, 2 cartas).

**Restantes da lista de "base cost":** OP12-102, OP14-034, OP15-002,
ST25-002/ST25-005 (mesma causa).

## 2026-07-16 (201) - OP12-041/OP15-014: "Activate Event from hand" e sinonimo de play_card (3 cartas)

Continuacao da varredura 1-por-1. "Activate up to N [Tipo] type Event
[with a base cost of X or less] from your hand" nunca era reconhecido
-- bloco inteiro ausente em OP12-041 e OP15-014. Achado ao generalizar
a busca (censo "activate...event...from your hand" em vez de so "base
cost"): **OP15-046** tem exatamente a mesma causa raiz mas nao estava
na lista original (sem filtro de custo no texto, so tipo).

**Insight que evitou reinventar mecanica:** `play_card` ja suporta
`card_type='EVENT'` nativamente no executor E em `_step_is_viable`
(usado por outras cartas ja no banco) -- "Activate" um Event da mao e
semanticamente IDENTICO a "Play" um Event da mao. So faltava o parser
reconhecer o sinonimo de verbo. Nova funcao dedicada
`parse_activate_event_from_hand` (NAO integrada em `parse_play_generic`,
usada por centenas de cartas onde "activate" tem outros significados --
`[Activate:Main]`, "set as active" de DON!! -- misturar teria risco
alto de regressao).

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=3 (confirmadas contra
`card_text`, incluindo o custo `DON!! 1` de OP12-041 que tambem
aparece corretamente capturado). 1 teste dirigido novo com EXECUCAO
real (`test_activate_event_from_hand_sinonimo_de_play`): confirma que
SO o Event correto e jogado da mao (nao um Character isca no mesmo
hand), vai pro trash de verdade. `smoke_fast.py` (126 checks) verde,
`smoke_test.py` amplo verde, `smoke_test_broad.py` **7/7** (essa rodada
demorou ~20min, bem acima do usual -- consistente com a pendencia de
performance ja documentada em TODO.md pra decks aleatorios especificos,
nao relacionado a este fix). Registro:
`parser_audits/2026-07-16_activate_event_from_hand.json`
(`resolution_scope: global`, 3 cartas).

**Restantes da lista de "base cost":** OP12-081, OP12-102, OP14-034,
OP15-002, ST25-002/ST25-005 (mesma causa).

## 2026-07-16 (200) - OP12-024: nova condicao don_attached_total_gte (3 cartas)

Continuacao da varredura 1-por-1 da lista de "base cost" (pedido do
usuario). "If you have a total of N or more given DON!! cards" (limiar
NUMERICO) nunca existia -- so `has_don_attached` (checa so ">=1")
existia. OP12-015 (buff +2000 power), OP12-024 (rest_opp_character) e
OP13-112 (Blocker) disparavam SEMPRE, sem checar DON anexado nenhum.

Nova condicao `don_attached_total_gte`, soma `don_attached` do lider +
todos os `field_chars`. Adicionada nos 2 checadores do projeto que ja
tinham `has_don_attached` (`_check_conditions` e
`_effect_conditions_met`). Interessante: as 3 cartas exercitam 3
CAMINHOS de execucao diferentes que convergem no mesmo checador ja
corrigido -- `execute()` (when_attacking de OP12-024),
`apply_your_turn_buffs()` (passive buff_power self de OP12-015) e
`apply_conditional_keyword_passives()` (passive gain_blocker de
OP13-112) -- confirma que centralizar a correcao no checador comum
(em vez de cada mecanismo ter sua propria logica) foi a decisao certa.

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=3 (confirmadas contra
`card_text`). 1 teste dirigido novo com EXECUCAO real
(`test_don_attached_total_gte_condicao_nova`): prova os 2 caminhos de
execucao distintos (buff aplica/nao aplica conforme DON anexado; Blocker
so liga com DON suficiente somado entre lider+campo). `smoke_fast.py`
(122 checks) verde, `smoke_test.py` amplo verde, `smoke_test_broad.py`
**7/7**. Registro:
`parser_audits/2026-07-16_don_attached_total_gte.json`
(`resolution_scope: global`, 3 cartas).

**Restantes da lista de "base cost":** OP12-041/OP15-014 (mesma causa
-- bloco inteiro "Activate Event from hand com base cost" ausente),
OP12-081, OP12-102, OP14-034, OP15-002, ST25-002/ST25-005 (mesma
causa).

## 2026-07-16 (199) - EB03-021 generalizado revela familia grande: place-bottom-deck, Life cards, e mecanica NOVA de turno extra (5 cartas)

Fechamento da familia "EB03-021" (varredura 1-por-1, pedido do usuario).
Comecou pequeno (2 alvos encadeados numa carta so) e cresceu por causa
de 2 decisoes do usuario nesta rodada: (1) "corrigir de maneira
global... e deixar de previsao pra novas cartas" -- generalizei o
regex em vez de hardcodear pro caso de 2 alvos; (2) "vasculhar Place no
banco pra colocar nas familias certas" -- censo de 36 cartas revelou 2
familias adicionais nao relacionadas ao pedido original.

**1) `parse_place_bottom` generalizada (EB03-021, 1 carta):** reescrita
pra ser ORDEM-AGNOSTICA (extrai custo/power de cada clausula
independente, nao 2 grupos sequenciais assumindo que "cost" vem antes
de "power" no texto) e reconhecer QUALQUER numero de alvos encadeados
via "and up to N Character(s)" -- nao hardcoded pro caso de 2.

**2) Regressao pega durante a generalizacao, corrigida na funcao certa
(3 cartas: EB01-053, OP05-096, OP09-101):** a nova regex, mais estrita
(exige "deck" no destino), corretamente parou de capturar essas 3 --
que na verdade usam "Place ... your opponent's/their Life cards" (nao
"deck"!). Confirmado: ja existia `parse_opp_char_to_opp_life`, uma
funcao DEDICADA e correta pra essa mecanica exata (so aceitava "add",
nao "place"). Estendida pra aceitar "place" como sinonimo de verbo e
"their"/"your opponent's" como sinonimos de destino, mais um bug
lateral achado no processo (filtro de tipo buscava no TEXTO INTEIRO em
vez de escopado ao match, vazando de uma condicao nao relacionada em
OP05-096).

**3) Mecanica NOVA (OP05-119, unica carta): turno extra.** Texto real:
"DON!! -10: Place all of your Characters except this Character at the
bottom of your deck in any order. Then, **take an extra turn after this
one**." Nao existia NADA no motor pra "jogar 2 vezes seguidas" -- nem
parser, nem engine. Implementado:
- `place_own_character_bottom_deck`: acao ja existia como STRING em 1
  funcao de custo, mas sem parser real nem executor nenhum. Novo branch
  em `parse_place_bottom` + executor novo.
- `take_extra_turn`: novo campo `GameState.extra_turn_pending` (incluido
  no `__deepcopy__`), executor so seta a flag. `OPTCGMatch.simulate()`
  e `replay_optcg.py run()` refatorados de alternancia fixa (`turn_num
  % 2`, sem estado) pra um ponteiro "quem joga agora" que repete o
  MESMO jogador quando a flag esta setada apos o turno, resetando-a em
  seguida. Ambos os loops (motor + replay) atualizados pra nao
  divergir.

**4) "in any order" deixa de ser arbitrario (pedido explicito do
usuario):** `place_own_character_bottom_deck` ordena os alvos por
`board_value()` DESCENDENTE antes de mover -- o mais FORTE fica mais
perto do topo do deck (comprado mais cedo se o deck chegar la algum
dia), nao a ordem que o codigo encontrou primeiro. **Dividia tecnica
registrada em TODO.md**: os OUTROS pontos pre-existentes que tratam "in
any order" como irrelevante (ex: `place_from_trash_bottom_deck`) NAO
foram tocados nesta rodada (escopo maior, fila propria) -- documentado
como pendencia formal, nao esquecido.

**5) Metodologia registrada em CLAUDE.md (obrigacao do projeto,
pedido explicito):** corrigir a FORMA do bug (ordem de clausulas,
sinonimos de verbo, N alvos), nao o texto exato da carta-gatilho.
Tambem salvo em memoria.

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=5 (confirmado que as 6
cartas JA corretas via `place_opp_char_to_opp_life` nao foram
duplicadas/regredidas -- essa foi minha 1a tentativa de fix, corrigida
antes de prosseguir). 4 testes dirigidos novos com EXECUCAO real:
2 alvos encadeados, variantes de fraseado (execucao real confirma
personagem vai pra vida do PROPRIO oponente), ordenacao estrategica no
fundo do deck (prova via indices), e o LOOP de `simulate()` repetindo o
mesmo jogador (monkeypatch de `play_turn`, sem precisar montar uma
partida completa). `smoke_fast.py` (109 checks) verde. `smoke_test.py`
amplo: 2 falhas iniciais eram um teste PRE-EXISTENTE que assumia o
comportamento ERRADO antigo de OP05-096 -- corrigido junto com um peso
que faltava em `_resolve_choice` pra `place_opp_char_to_opp_life`.
TODOS OS TESTES PASSARAM apos o ajuste. `smoke_test_broad.py` **7/7**.
Registro: `parser_audits/2026-07-16_place_bottom_deck_e_extra_turn.json`
(`resolution_scope: global`, 5 cartas).

## 2026-07-16 (198) - Fecha o padrao transversal "power of N" (ordem invertida) em 4 mecanismos, 6 cartas

Continuacao direta do bloco 197 (correcao de metodologia do usuario).
Antes de corrigir a lista de 12 "base cost", o usuario pediu pra
reanalisar as propostas anteriores a luz do padrao transversal, e depois
corrigiu a si mesmo: nao era "power more/less"/"cost more"/"cost less"
sem "or" (0 ocorrencias no banco), e sim **"power N or more"/"power N or
less"/"cost N or more"/"cost N or less"** (substantivo ANTES do numero).
Censo dessa forma achou so 1 caso real (`cost N or less` -> OP10-079,
typo oficial sem "of"). Investigando mais a fundo achei a familia
GRANDE de verdade: **"(base) power OF N"** (numero DEPOIS de "power",
com "of" no meio) -- 7 cartas no banco, 5 com bug real.

**As 5 cartas quebradas, 4 mecanismos diferentes (prova concreta da
tese do usuario -- nao e 1 mecanismo so):**
- OP09-015, OP14-064: `ko` sem `power_lte`/`power_eq`
- OP13-062: `bounce` sem `power_lte`
- OP14-062: `rest_opp_character` sem `power_lte`
- OP06-012: condicao de imunidade sem filtro nenhum, e com uma variante
  extra ("Leader OR Character", nao so Character) -- nova chave
  `opp_leader_or_char_power_gte` (distinta de `opp_char_power_gte`
  existente pra nao mudar comportamento de outras cartas que so
  mencionam "Character").

**Fix:** cada um dos 4 mecanismos ganhou um branch/alternativa aceitando
"(?:base )?power of N" alem do "N (base) power" ja suportado. O
checador de imunidade (`_immunity_conds_met`, 3o checador de condicoes
do projeto -- mesmo padrao recorrente ja documentado varias vezes)
ganhou a nova chave, olhando `opp.leader` + `opp.field_chars` juntos.

**Extra da mesma rodada:** OP10-079 (typo oficial "a cost 5 or less",
sem "of") -- mesma tolerancia de fraseado, mesmo regex de `ko`.

**Censo confirmado completo (per pedido explicito do usuario):**
"power N or more/or less" e "cost N or more/or less" sem "of" = 0
ocorrencias adicionais no banco. "N cost" isolado (128 cartas) e todo
"+N cost" de BUFF (`gains +N cost`), padrao ja tratado, nao relacionado.
Nenhuma pendencia nova alem do que ja foi corrigido.

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=6 (todas confirmadas
contra `card_text`). 1 teste dirigido novo com EXECUCAO real
(`test_power_of_n_ordem_invertida_transversal`): confirma o parse
correto dos 4 mecanismos + o typo de custo, e prova em execucao real
que a imunidade de OP06-012 responde ao LIDER do oponente (nao so
Character -- 2 cenarios, lider forte vs lider fraco). `smoke_fast.py`
(122 checks) verde, `smoke_test.py` amplo verde, `smoke_test_broad.py`
**7/7**. Registro:
`parser_audits/2026-07-16_power_of_n_ordem_invertida_transversal.json`
(`resolution_scope: global`, 6 cartas).

**Ainda pendente:** os 9-10 bugs individuais da lista de "base cost"
(cada um com causa raiz PROPRIA e distinta, ja categorizados no bloco
anterior -- OP12-041/OP15-014 compartilham 1 causa, os outros 7-8 sao
todos diferentes entre si). Aguardando decisao do usuario sobre
granularidade de confirmacao pra cada um.

## 2026-07-16 (197) - Correcao de metodologia do usuario: "base power/cost" e padrao TRANSVERSAL, nao 1 mecanismo so (registro, sem fix de codigo)

Ao apresentar o censo de "base cost" (continuacao do bloco 196), eu
generalizei errado: tratei "base power" como se tivesse sido um bug de
UM mecanismo so (bounce). O usuario corrigiu: esse padrao de fraseado
("base power", "base cost", e tambem "power more"/"power less"/"cost
more"/"cost less" sem a palavra "or" no meio) pode vazar em QUALQUER
mecanismo do parser -- KO, rest, trash, travas de "nao fica ativo no
Refresh", concessao condicional de keyword ("ganha [Rush]/[Double
Attack]/[Blocker] se [Character] tiver base power/cost N"), buffs/
debuffs, condicoes de contagem, etc.

**Sem fix de codigo neste bloco** -- registro de metodologia, pra nao
esquecer da proxima vez que uma varredura desse tipo aparecer. Escrito
em 2 lugares: memoria pessoal (`project_base_power_cost_padrao_
transversal`) e `scriptis_da_ia/parser_audits/README.md` (nova secao
"Padrao transversal: base power/base cost/power more/power less/cost
more/cost less"), pra qualquer sessao -- Claude ou Codex -- ver isso ao
abrir a pasta de auditorias, nao so eu.

**Regra pratica registrada:** o bug NUNCA e semantico (`card.power`/
`card.cost` no engine JA SAO os valores base, buffs isolados em
`power_buff`/`cost_buff`) -- e sempre um destes dois: (1) o regex do
parser nao reconhece a variante de fraseado, ou (2) o executor grava o
campo certo no JSON mas esquece de repassar pro `eligible_cards` (foi
exatamente o caso do `bounce`, bloco 196).

**Trabalho pendente, ainda aguardando decisao do usuario sobre
granularidade:** os 12 suspeitos reais de "base cost" ja levantados
(EB03-021, EB03-036, OP12-024, OP12-041, OP12-081, OP12-102, OP14-034,
OP15-002, OP15-014, ST25-002, ST25-005 -- espalhados em ~7 mecanismos
diferentes: place_bottom_deck, ko, rest_opp_character, ativar Event por
custo, condicao de contagem por custo, buff com filtro de custo,
condicao de "ativou Event de custo N neste turno") ainda nao foram
corrigidos. Por causa desta correcao de metodologia, a proxima rodada
de censo deve TAMBEM cobrir "power more"/"power less"/"cost more"/"cost
less" (sem "or"), nao so "base X", antes de comecar a corrigir.

## 2026-07-16 (196) - Fecha o achado de "base power" no bounce: power_eq/power_gte nunca eram consumidos (4 cartas)

Continuacao direta do bloco 195 (censo global de "base power" pedido
pelo usuario). Confirmado e corrigido, com confirmacao explicita do
usuario antes de codar.

**Bug:** a variante de `bounce` por poder ("return up to N Character(s)
with N base power [or more/or less] to the owner's hand") ja gravava
`power_eq`/`power_gte`/`power_lte` corretamente no JSON desde 15/07, mas
o EXECUTOR de `bounce` so repassava `power_lte` pro `eligible_cards` --
`power_eq`/`power_gte` eram silenciosamente ignorados. EB03-025,
EB03-027 e OP14-058 (usam `power_eq`, poder EXATO) bounceavam QUALQUER
personagem do oponente, sem checar poder nenhum. OP11-051 (usa
`power_lte`) ja funcionava certo por coincidencia.

**Fix:** adicionado `power_gte`/`power_eq` na chamada de `eligible_cards`
dentro do executor de `bounce` (mesmo padrao ja usado em `play_from_trash`/
`ko`). Nao mexi no campo `power_base_only` (continua sendo escrito pelo
parser, documenta intencao mas nao precisa de logica extra -- confirmado
com o usuario que `card.power` no nosso modelo JA E base power).

**Validado:** `diff_parser.py` 0/0/0 (fix e engine-only). 1 teste
dirigido novo com EXECUCAO real (`test_bounce_por_power_eq_base_power`):
confirma que so o alvo com power EXATO e bounced, um alvo de power
diferente e poupado. `smoke_fast.py` (109 checks) verde, `smoke_test.py`
amplo verde, `smoke_test_broad.py` **7/7**. Registro:
`parser_audits/2026-07-16_bounce_power_eq_gte_never_consumed.json`
(`resolution_scope: global`, 4 cartas).

**Pendencias do usuario: FECHADAS.** OP16-008 confirmado ja correto
(falso alarme), OP01-086 "4" corrigido (bloco 195), censo de "base
power" concluido com este bloco. Nada pendente de rodadas anteriores.

## 2026-07-16 (195) - Fecha pendencias antes de continuar (pedido explicito do usuario)

Usuario pediu pra fechar pendencias abertas antes de seguir pra novas
familias, em vez de deixar rastro. Verificado:

**OP16-008 "8000" -- FALSO ALARME, ja estava correto.** O usuario
citou esse numero como pendente, mas ao reconferir no auditor ele ja
aparecia no `power_lte:8000` do step `ko` desde o fix da familia
anterior (bloco 194). Nenhuma acao necessaria, so confirmado.

**OP01-086 "4" -- pendencia real, corrigida.** O bloco `[Trigger]`
SEPARADO da mesma carta ("Return up to 1 CARD with a cost of 4 or less
to the owner's hand") ainda estava ausente -- o fix anterior (bloco
192) so tinha corrigido o `[Counter]`. Causa: o regex generico de
bounce so aceitava "character(s)" como substantivo; esse `[Trigger]`
usa "card" em vez de "Character". Estendido o mesmo regex pra aceitar
"card(s)" como sinonimo (censo confirmou: unica carta no banco com essa
variante). Teste dirigido existente
(`test_overheat_counter_buff_e_bounce_active_only`) estendido pra
cobrir tambem o bounce do Trigger via execucao real. `diff_parser.py`
PERDEU=0, isolado em OP01-086. `smoke_fast.py`/`smoke_test.py`/
`smoke_test_broad.py` (7/7) verdes. Registro:
`parser_audits/2026-07-16_OP01-086_bounce_card_noun_variant.json`.

**Censo global de "base power" (pedido explicito do usuario, pra nao
deixar a duvida solta):** 80 cartas mencionam "base power" no texto.
A maioria ja funciona certo porque `card.power` no nosso modelo JA E o
base power (buffs isolados em `power_buff`, nunca mutam `.power`) --
confirmado com o usuario nas familias anteriores. Achado o bug real:
a variante de `bounce` por power ("return up to N Character(s) with N
base power [or more/or less] to the owner's hand") afeta 4 cartas
(EB03-025, EB03-027, OP11-051, OP14-058) -- o parser ja grava
`power_eq`/`power_lte` certo no JSON, mas o EXECUTOR de `bounce` so
repassa `power_lte` pro `eligible_cards`, nunca `power_eq`. Resultado:
EB03-025/EB03-027/OP14-058 (que usam `power_eq`, poder EXATO) hoje
bounceiam QUALQUER personagem do oponente, ignorando o filtro de poder
por completo. OP11-051 (usa `power_lte`) ja funcionava certo por
coincidencia. **Fix apresentado ao usuario, aguardando confirmacao no
momento deste registro** -- adicionar `power_eq`/`power_gte` na chamada
de `eligible_cards` do executor de `bounce`.

## 2026-07-16 (194) - Varredura continua: custo "trash 1 of your Characters" (campo) virava trash_from_hand (mao) em 5 cartas, + bug de avaliacao pre-existente em ko_own_character

Novo protocolo em vigor (pedido do usuario): antes de codar qualquer
familia, apresentar o plano (o que muda, por que, escopo) e esperar
confirmacao explicita. Este bloco documenta a 3a familia da retomada
(1a: OP01-086, bloco 192; 2a: EB02-039/OP06-015, bloco 193).

**Custo `trash_own_character` (novo tipo, 5 cartas):** "you may trash N
of your Characters [filtro]:" sem NENHUM "from your hand" no texto
inteiro (OP06-015, OP13-053, OP16-008, EB04-048, OP07-085) caia no
regex generico de `trash_from_hand`, que so exige a palavra "character"
aparecer em algum lugar da clausula. Sacrificio de personagem do proprio
CAMPO virava descarte da MAO -- fonte errada e filtros perdidos. Criado
tipo de custo dedicado, distinto de `ko_own_character` (dispara [On
K.O.], regra K.O. != Trash) e de `trash_from_hand`. Filtros: `filter_type`
(OP13-053), `power_gte` (OP06-015, "or more"), `power_eq` (OP16-008, "10000
base power" sem qualificador).

**Sobre "base power" (esclarecido com o usuario antes de codar):** o
`card.power` no nosso modelo JA E o base power -- buffs ficam isolados
em `power_buff`, nunca mutam `.power`. Entao `power_eq` comparando
`card.power` diretamente ja e correto pra "N base power" sem precisar de
campo dedicado novo. **Achado colateral registrado, NAO resolvido:**
existe um campo `power_base_only` ja sendo ESCRITO pelo parser em
`parse_bounce` (variante "return up to N Character(s) with N base
power") mas NUNCA lido em lugar nenhum do executor -- filtro morto. Fica
pra uma familia futura.

**Bug pre-existente encontrado e corrigido junto (confirmado com o
usuario -- "quero que resolva esse fix de so olhar a mao"):**
`_worth_paying_optional_costs` (decide se vale a pena pagar um custo
opcional) tinha branches dedicados pra alguns tipos de custo mistos
(mao+campo), mas `ko_own_character` -- que ja existia ha tempos, custo
PURAMENTE de campo -- sempre caia no branch generico final, que so
avalia `self.me.hand` (tamanho, valor da pior carta). Um efeito com
custo de campo podia ser recusado so por causa da MAO, recurso que o
custo nem toca. Adicionado branch novo pra `ko_own_character` +
`trash_own_character` juntos (mesma causa raiz), usando `board_value()*10
<=60` sobre `me.field_chars` filtrado -- com `return` definitivo (nao e
escolha entre mao/campo como os outros branches, e so campo).

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=6 (as 5 cartas do custo +
EB02-039 do bloco anterior, todas confirmadas contra `card_text`). 1
teste dirigido novo com EXECUCAO real
(`test_trash_own_character_custo_novo_e_avaliacao_por_campo`): confirma
o parse dos 3 padroes de filtro, confirma que o custo E PAGO mesmo com
MAO VAZIA quando ha alvo barato no campo (prova a correcao do bug de
avaliacao), e confirma que sem alvo elegivel o custo nao e pago.
`smoke_fast.py` (105 checks) verde, `smoke_test.py` amplo verde (zero
regressao em custo/heuristica existente), `smoke_test_broad.py` **7/7**.
Registro: `parser_audits/2026-07-16_OP06-015_trash_own_character_cost.json`
(`resolution_scope: global`, 5 cartas).

**Suspeitos restantes:** ainda nao re-rodei a contagem formal do
auditor apos esta familia -- proximo passo antes de continuar, per o
protocolo combinado com o usuario.

## 2026-07-16 (193) - Varredura continua: EB02-039/OP06-015 faixa "N to M power" virava buff fantasma

Usuario pediu um novo protocolo: parar apos CADA familia corrigida,
reportar quantas cartas suspeitas restam, e perguntar antes de seguir
pra proxima. Este bloco documenta a 2a familia da retomada (a 1a foi
OP01-086, bloco 192).

**EB02-039 GERMA 66 (bug grave) + OP06-015 Lily Carnation (filtro
ausente), mesma causa raiz:** "play up to 1 Character card with 5000 to
7000 power ..." -- o guard de `parse_power_buff` so excluia "N power or
less/or more" (imediatamente apos o numero); a faixa "N to M power" nao
tinha guard nenhum, entao o SEGUNDO numero da faixa (7000) virava um
`buff_power` FANTASMA (target=self, na propria carta fonte) em
EB02-039. Adicionado guard novo pra faixa "N to M power". Em OP06-015 o
mesmo padrao ja escapava do bug (guard de "from your trash" evitava por
coincidencia), mas o `play_from_trash` nunca sabia filtrar por faixa de
power -- adicionado `power_gte`/`power_lte` la tambem.

**Mecanica nova (unica no banco, so EB02-039):** "and the same card name
as the trashed card" -- o `play_from_trash` so pode escolher uma copia
com o MESMO NOME do que foi trashado como custo do proprio bloco. Novo
atributo `self._last_trashed_names` (setado dentro de `_pay_costs` no
branch `trash_from_hand`, consumido pelo novo filtro
`same_name_as_trashed`) -- **deliberadamente separado** de
`_last_selected` (mecanismo ja existente de memoria entre steps) pra
nao colidir com ele.

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=2 (EB02-039 e OP06-015,
ambos confirmados contra `card_text`). 1 teste dirigido novo com
EXECUCAO real (`test_germa66_power_range_e_mesmo_nome_do_trashado`):
confirma que o buff fantasma sumiu e que so o homonimo dentro da faixa
de power e jogado do trash (nao um personagem na faixa mas com nome
diferente, nem um personagem com o nome certo mas fora da faixa).
`smoke_fast.py` verde, `smoke_test.py` amplo verde, `smoke_test_broad.py`
**7/7**. Registro:
`parser_audits/2026-07-16_EB02-039_power_range_misparsed_as_buff.json`
(`resolution_scope: global`, 2 cartas).

**Achado ao lado, NAO corrigido nesta familia (fora de escopo, guardar
pra depois):** o custo de OP06-015 ("you may trash 1 of your Characters
with 6000 power or more:") esta parseado como `trash_from_hand`, mas o
texto diz "of your Characters" sem "from your hand" -- pode ser
`trash_self`/sacrificio de CAMPO, nao da mao. Precisa censo global
proprio antes de mexer (mesmo protocolo de sempre).

**Suspeitos restantes apos esta familia:** auditor ainda nao re-rodado
formalmente nesta sessao (2 familias corrigidas ate aqui, OP01-086 e
EB02-039/OP06-015 -- reduz o numero de suspeitos por numero perdido em 3
cartas no total: 1+2). Proximo passo antes de continuar: reportar a
contagem exata ao usuario, per o novo protocolo combinado.

## 2026-07-16 (192) - Retomada da varredura ampla: OP01-086 bounce com qualificador "active" (367 -> em progresso)

Usuario pediu pra continuar corrigindo cartas suspeitas do
`audit_parser_coverage.py`. Confirmado 367 suspeitos (mesmo numero do
bloco 189). Os 4 primeiros da lista por uso real (OP15-008, OP06-022,
OP09-118, OP13-080) sao FALSOS POSITIVOS ja confirmados corretos em
sessoes anteriores (cluster "up to 1 de alvo implicito, count=1 nunca
literalizado no JSON") -- pulados sem re-trabalho. Passei a filtrar por
`--min-severity 2` (2+ numeros perdidos por carta) pra achar bugs reais
mais rapido, ja que suspeitos de severidade 1 tem taxa alta de falso
positivo desse mesmo cluster.

**OP01-086 Overheat, corrigido:** `[Counter]` perdia por completo a
clausula "Then, return up to 1 active Character with a cost of 3 or
less to the owner's hand" -- so o `buff_power` sobrevivia. Causa: a
regra generica de `bounce` ("return up to N Character(s) with a cost of
X or less") exigia "Character(s)" logo apos a contagem; a palavra
"active" no meio quebrava o match. Censo global confirmou OP01-086 como
UNICA carta no banco com esse qualificador nessa frase exata (10 cartas
tem "Then, [algo]" apos Counter buff, mas cada uma com um "algo"
diferente -- draw, trash do deck, bounce proprio, bounce condicional;
so essa usa "active Character" sem posse). Regex estendida pra aceitar
"active" opcional, virando `active_only: true` no step -- `bounce`
nunca repassava esse filtro pra `eligible_cards` (so `rest_opp_character`
tinha, `rested_only` de bounce ja existia mas `active_only` nao),
corrigido junto no executor.

**Validado:** `diff_parser.py` PERDEU=0, mudanca isolada em OP01-086. 1
teste dirigido novo com EXECUCAO real
(`test_overheat_counter_buff_e_bounce_active_only`): confirma que o
bounce so afeta o alvo ATIVO dentro do custo, ignora o restado (mesmo
custo baixo) e o caro (mesmo ativo). `smoke_fast.py` verde,
`smoke_test.py` amplo verde, `smoke_test_broad.py` **7/7** partidas
aleatorias sem excecao. Registro de auditoria:
`parser_audits/2026-07-16_OP01-086_bounce_active_qualifier.json`
(`resolution_scope: isolated_after_global_scan`).

**Continuando a varredura na mesma sessao** -- proximos suspeitos reais
identificados por severidade (nao falsos positivos, ainda nao
corrigidos): OP04-094 Trueno Bastardo (bloco `[Main]` inteiro ausente,
substituicao condicional de custo por trash_gte), OP06-015 Lily
Carnation (faixa de power 2000-5000 no `play_from_trash`, custo cost>=6000
no trigger de sacrificio), OP10-058 Rebecca -- codigo diferente de
OP05-091, mesmo nome -- (bloco `on_play` reveal+play duplo ausente),
OP15-097 (bloco `[Main]` inteiro ausente, so o `activate_main_effect` do
trigger sobrevive), OP16-003 Edward.Newgate (custo opcional "reveal 2
Character cards com 8000 power" ausente, debuff sempre incondicional),
EB02-022 Usopp (condicao `chars_lte` com filtro de power ausente + falta
`power_lte` no `play_card`), EB02-039 GERMA 66 (bug de mis-parse: faixa
de power "5000 to 7000" no personagem JOGADO esta sendo lida como
`buff_power` no proprio character da fonte), ST13-003 Luffy (bloco
`activate_main` inteiro ausente).

## 2026-07-16 (191) - Resolve a pendencia do bloco 190: caminho de memoria do Codex corrigido

O usuario perguntou ao proprio Codex sobre o mecanismo real de memoria dele
e trouxe a resposta oficial, resolvendo a pendencia deixada no bloco 190.
Confirmado: o erro anterior foi assumir que a memoria do Codex segue a
mesma estrutura do Claude Code (`.claude\projects\<projeto>\memory\`).

**Fatos corretos, pro registro:** o Codex tem memoria local experimental,
mas o caminho e GLOBAL (nao por projeto) -- `C:\Users\arthu\.codex\memories\`
nesta maquina, ativada via `/memories` no CLI ou `[features] memories = true`
no `config.toml`. Sao arquivos de estado gerado automaticamente, NAO
documentacao obrigatoria nem portavel entre maquinas. O mecanismo oficial
pra instrucoes persistentes do repo e o proprio `AGENTS.md`; decisoes
indispensaveis devem viver em `HANDOFF.md`/`TODO.md`/documentos
versionados, nunca depender de memoria local pra regra de arquitetura.
Fontes: https://learn.chatgpt.com/docs/customization/memories e
https://learn.chatgpt.com/docs/agent-configuration/agents-md.

**`AGENTS.md` corrigido:** a secao "LEITURA OBRIGATORIA ANTES DE QUALQUER
COMMIT" nao aponta mais pro caminho inexistente
(`.Codex\projects\...\memory\MEMORY.md`, nunca existiu no disco, achado no
bloco 190). Agora manda ler `HANDOFF.md`+`TODO.md`+o proprio `AGENTS.md`,
e menciona a memoria real do Codex só como contexto OPCIONAL (nunca
pre-requisito de commit). As 2 regras-chave (bot=olhos/maos, objetivo do
bot) que antes apontavam pra arquivos de memoria do Claude (`memory/
feedback_dois_motores.md`, `memory/project_objetivo_bot.md` -- inexistentes
do ponto de vista do Codex) ficaram inline no proprio `AGENTS.md`, já que
o arquivo agora e a fonte auto-suficiente.

Pendencia do bloco 190 encerrada. Nenhum trabalho de parser nesta entrada.

## 2026-07-16 (190) - Checkpoint de troca de sessao: Claude -> Codex

Usuario pediu pra conferir o estado local/remoto e deixar tudo registrado
antes de trocar pra uma sessao Codex. Nao houve trabalho de parser nesta
entrada -- so verificacao + acerto de documentacao de handoff.

**Estado confirmado:** `git status` limpo (so `.claude/` e `AGENTS.md`
nao versionados), `main` sincronizado com `origin/main` em `c176eaa`
(bloco 189, "Life para topo do deck"). `smoke_fast.py` verde na HEAD
atual. Auditor (`audit_parser_coverage.py`) em **367 suspeitos**
conforme registrado no bloco 189 -- nao foi refeita a contagem, o numero
ja e a fonte de verdade do ultimo trabalho real.

**`AGENTS.md` corrigido e commitado nesta entrada:** o arquivo (guia
equivalente ao `CLAUDE.md`, mas voltado pro Codex) tinha sobrado de uma
geracao por substituicao mecanica de texto -- titulo virou "Codex / Codex"
e uma frase virou "Codex ou Codex quem estiver na sessao", ambos
deveriam dizer "Claude" numa das pontas (o arquivo fala de colaboracao
ENTRE as duas IAs, nao duplica a mesma). Corrigido nos 3 lugares.

**Pendencia que o usuario precisa confirmar, nao resolvida aqui:**
`AGENTS.md` linha 8 aponta pra
`C:\Users\arthu\.Codex\projects\C--Projetos-TI-analidador-de-decks-optcg\memory\MEMORY.md`
como leitura obrigatoria de memoria pro Codex -- **esse caminho NAO
EXISTE no disco** (`Test-Path` confirmou False). Foi copiado por analogia
do caminho real do Claude Code (`C:\Users\arthu\.claude\projects\...`),
mas o Codex CLI pode nao ter um sistema de auto-memoria com essa mesma
convencao de pasta -- nao fiz nenhuma suposicao adicional sobre qual e o
caminho/mecanismo certo do Codex, porque eu nao tenho como verificar isso
daqui. Se o Codex tiver equivalente, ajustar a linha; se nao tiver,
remover a secao e decidir outro jeito de repassar as licoes acumuladas
(talvez copiar o conteudo relevante de `memory/` do Claude direto pro
`AGENTS.md`, ja que sao as mesmas regras de projeto, independente de IA).

**Para a proxima sessao (Codex): ler nesta ordem** `AGENTS.md` -> este
`HANDOFF.md` (blocos mais recentes primeiro, pelo menos ate ~180 pra
pegar o contexto do gate de auditoria global) -> `git log --oneline -10`
-> `git status`. O trabalho real em andamento e a varredura continua de
`scriptis_da_ia/audit_parser_coverage.py` (367 suspeitos restantes,
metodo de clustering documentado nos blocos anteriores), sempre com o
gate de `scripts/verify_parser_global_audit.py` bloqueando commit sem
JSON de auditoria em `scriptis_da_ia/parser_audits/` (bloco 184 explica
o gate; README da propria pasta tem o modelo).

## 2026-07-16 (189) - Life para topo do deck + smoke amplo 7/7

ST13-016 revelou a familia "look at all Life; place 1 at top of deck; return
rest". O censo global encontrou ST13-004 e ST13-016. O parser ja emitia
`peek_life`, mas nao a mudanca de zona; agora emite `life_to_deck_top`, e o
executor escolhe uma carta da Life conhecida, remove-a da Life e a coloca no
topo real do deck (fim da lista).

A investigacao encontrou uma segunda falha em ST13-004: os subparsers
ordenavam `peek_life` antes de `gain_life`, contrariando o texto. A sequencia
agora e deck->Life, olhar/reordenar Life, Life->topo do deck. Card List oficial
confirmou ambos os textos. Testes cobrem as duas actions, a ordem de ST13-004
e a mudanca de zona de ST13-016.

Por decisao do usuario, `smoke_test_broad.py` agora usa **7 partidas** por
padrao; checkpoints maiores continuam disponiveis com `SMOKE_BROAD_N=40`.
Validacao: py_compile, smoke direcionado, **7/7**, diff inicial MUDOU 2 /
PERDEU 0, snapshot final 0/0/0. Auditor **367 suspeitos** (368 -> 367).
Registro: `parser_audits/2026-07-15_life_to_deck_top_after_peek.json`.

## 2026-07-15 (188) - Life para mao como custo: 376 -> 368

ST09-012 revelou uma familia de **42 cartas-base** com "You may add N card
from the top/bottom of your Life to your hand: efeito". O parser descartava
esse trecho por reconhecer corretamente que nao era beneficio, mas `parse_costs`
nao o recriava como custo; assim buffs, KO, draw, ramp e play resolviam gratis.

O parser agora emite `life_to_hand` em `costs`, preservando `life_top`,
`life_bottom` ou `life_top_or_bottom`. Executor e pagabilidade exigem Life,
movem a carta para a mao antes do efeito e respeitam `cant_take_life_this_turn`.
Teste de ST09-012 prova pagamento + buff e bloqueio integral sem Life; censo
programatico confirmou custo presente nas 42 cartas. Card List oficial
confirmou Yamato, Flampe e Chopper.

Validacao barata conforme pedido do usuario: py_compile, smoke direcionado,
diff inicial MUDOU 42 / PERDEU 0, auditor **368 suspeitos** (376 -> 368),
snapshot final 0/0/0. O smoke amplo 40/40 foi deliberadamente adiado para um
checkpoint posterior, nao executado neste lote.

## 2026-07-15 (187) - Vander Decken: custo alternativo mao/campo

O censo global de "trash [tipo] from hand OR [nome] from hand or field"
encontrou uma unica carta-base: OP06-033 Vander Decken IX. O custo anterior
era `trash_from_hand` sem filtro, portanto aceitava qualquer carta e ignorava
The Ark Noah no campo.

O parser agora emite o custo declarativo
`trash_typed_hand_or_named_hand_field`: Fish-Man da mao OU The Ark Noah da
mao/campo. Executor, pagabilidade e avaliacao opcional consultam a mesma
estrutura; ao pagar pelo campo, a Stage sai corretamente para o trash. Testes
cobrem as tres rotas validas e a rejeicao de carta sem tipo/nome elegivel.

Validacao: Card List oficial; censo completo; diff inicial MUDOU 1 / PERDEU
0; smoke direcionado passou; smoke amplo 40/40; snapshot final 0/0/0. Auditor
permaneceu em **376 suspeitos**, pois o parse antigo ja continha o numero 1 e
o auditor numerico nao detectava a semantica perdida. Registro:
`parser_audits/2026-07-15_typed_or_named_hand_field_cost.json`.

## 2026-07-15 (186) - DON estritamente menor + trash tipado: 379 -> 376

ST05-005 Carina revelou duas familias globais. O censo encontrou 5 cartas
com "opponent has more DON!! ... than you" (OP05-069, OP05-071, OP09-066,
ST05-005 e ST10-012): agora usam `don_fewer_than_opp_by_gte=1`, portanto
empate nao satisfaz a condicao. Antes os cinco efeitos eram incondicionais.

O censo de custo "trash N [tipo] type card(s) from your hand" encontrou 17
cartas. Dezesseis formas simples agora preservam `filter_type`; ST19-001/002
preservam tambem a cor black. O executor e a verificacao de viabilidade usam
os mesmos filtros, impedindo pagar com carta de tipo/cor ilegal. OP06-033
Vander Decken foi deliberadamente separado: sua escolha e composta (Fish-Man
da mao OU The Ark Noah da mao/campo) e nao pode ser reduzida ao custo simples;
deve ser o proximo lote proprio.

Card List oficial confirmou Carina, Law, Uta e Sengoku. Validacao: diff
GANHOU 0 / PERDEU 0 / MUDOU 20; smoke direcionado passou; smoke amplo 40/40;
snapshot final com 0/0/0; auditor **376 suspeitos** (379 -> 376). Registro:
`parser_audits/2026-07-15_strict_don_and_typed_trash.json`.

## 2026-07-15 (185) - Familia global "Under the rules": 381 -> 379

O censo completo de `Under the rules of this game` encontrou 8 codigos-base:
EB04-038, OP01-075, OP08-072, OP12-001, OP13-079, OP15-022, OP15-058 e
OP16-042. Nao eram um unico efeito: havia identidade alternativa, copias
ilimitadas, restricoes de construcao, Stage inicial, derrota por deck vazio e
tamanho especial do DON deck.

O parser agora concentra a familia em `game_rules.rules`, com subtipos
explicitos. `validar_deck` respeita copias ilimitadas e as restricoes de
Rayleigh/Imu; filtros globais reconhecem os nomes Trafalgar Law e Donquixote
Rosinante de EB04-038 via `CardData` imutavel; Enel inicia com 6 DON; e o Stage
do Imu e colocado pela regra estruturada, na ordem oficial (apos definir quem
comeca e antes da mao inicial), sem reler texto cru. A regra de Brook foi
estruturada; o comportamento atual ja encerra a partida no fim do turno com
deck vazio, e a semantica normal de deck-out deve ser auditada globalmente
antes de qualquer mudanca adicional.

Card List e Q&A oficiais confirmaram os textos e a ordem do Stage do Imu.
Validacao: diff GANHOU 1 / PERDEU 0 / MUDOU 7; snapshot final atualizado;
smoke direcionado passou; smoke amplo 40/40; auditor **379 suspeitos**
(381 -> 379). Registro mecanico:
`parser_audits/2026-07-15_under_rules_game_rules.json`.

Proximo candidato material no auditor: ST05-005 Carina, cujo parse atual perde
a condicao de DON proprio menor que o oponente e o custo de trash de carta
FILM da mao. Antes de corrigir, censar globalmente ambas as gramaticas.

## 2026-07-15 (184) - Gate obrigatorio de auditoria global por carta

Pedido do usuario: impedir Claude/Codex de corrigir uma carta pontualmente
sem antes mapear a mesma gramatica no banco inteiro. Lembrete textual nao era
suficiente; foi criado um gate mecanico de pre-commit.

`scripts/verify_parser_global_audit.py` detecta mudancas staged em
`gerar_effects_db.py` ou `card_effects_db.json` e exige um JSON NOVO em
`scriptis_da_ia/parser_audits/`. O schema obriga carta-gatilho, problema,
familia gramatical, consultas globais executadas, todos os codigos encontrados,
decisao, validacoes e escopo `global` ou `isolated_after_global_scan`. Caso
isolado so passa com exatamente uma carta em `cards_found`.

O hook versionado chama o validador e foi instalado em `.git/hooks` nesta
maquina. `scripts/setup-git-hooks.sh` continua instalando-o em clones novos.
`CLAUDE.md` registra a regra para ambas as IAs; README da pasta traz modelo e
explica que os JSONs sao evidencia de processo, nunca fonte de regras para o
engine. O registro da auditoria OP13-002 foi adicionado como primeiro exemplo.

Prova em indice Git temporario: parser alterado sem JSON novo retornou exit 1;
o mesmo parser com registro valido retornou exit 0. O gate exige arquivo novo,
portanto editar/reutilizar auditoria antiga nao libera outro lote.

## 2026-07-15 (183) - Ace: dano OU K.O. proprio 6000+: 382 -> 381

OP13-002 Portgas.D.Ace tinha dois efeitos fundidos em `on_opp_attack`: o draw
por dano/K.O. era executado junto do debuff defensivo e exigia trash da mao
incorretamente. O censo exato de `When you take damage or your Character...
is K.O.'d` encontrou uma unica redacao no banco; o censo mais amplo mostrou
que outros `or` pertencem a eventos diferentes e nao foram misturados nesta
gramatica.

O parser agora emite `when_damage_or_own_char_ko` com `DON x1`, once per turn,
`own_char_base_power_gte=6000` e draw separado. O dispatcher central resolve
o evento ao receber dano (inclusive Banish) ou quando Character proprio
elegivel e K.O.ado. O marcador once-per-turn vive na carta, nao na instancia
temporaria do executor.

O trabalho revelou e corrigiu uma lacuna adjacente real: K.O. por efeito no
handler generico e em `ko_selected` agora dispara o `[On K.O.]` da carta e o
evento do dono; antes o engine fazia isso apenas em batalha, apesar do TODO no
proprio codigo. Trash continua distinto de K.O. e nao dispara esses eventos.

Card List oficial confirmou os dois efeitos, DON x1, base power 6000+ e once
per turn. Validacao: diff GANHOU 0 / PERDEU 0 / MUDOU 1; 2614 cartas; smokes
curto e amplo passaram. Auditor: **381 suspeitos** (382 -> 381).

Competitividade: a fidelidade objetiva aumentou (menos efeito fantasma, K.O.
por efeito agora encadeia triggers reais), mas ainda nao ha prova de aumento
de win rate. A fila numerica caiu de 433 para 381 (-52; -12,0%); isso mede
cobertura do parser, nao forca de jogo. Win rate exige benchmark pareado com
seeds/decks fixos ou partidas reais apos a auditoria.

Proximo suspeito real: OP13-079 Imu (regra de deckbuilding custo de Event 2+)
ou, priorizando efeito de partida, OP13-080 e apenas falso positivo de alvo;
ST01-011 tambem e falso positivo. O primeiro gap material seguinte deve ser
confirmado no auditor reordenado antes da edicao.

## 2026-07-15 (182) - Character para Life do dono: 386 -> 382

OP12-117 Slam Gibson nao perdia apenas `cost_lte=9`: o parser interpretava
"add Character ... to the owner's Life" como se adicionasse uma carta do
topo do proprio deck. O censo global encontrou 8 codigos-base nessa familia:
OP03-123, OP06-103, OP06-107, OP11-116, OP12-117, P-085, ST07-017 e
ST09-015.

Foi criada a action unica `character_to_owner_life`, distinta de `gain_life`.
Ela preserva alvo proprio/oponente/qualquer lado, custo maximo, power exato,
tipo, exclusao de nome, face-up/down e destino topo/fundo/topo-ou-fundo. O
engine remove o Character do campo sem K.O., devolve DON anexado ao dono e
coloca a carta na Life do mesmo dono. Para alvo livre, prioriza a maior
ameaca adversaria; `life_top_or_bottom` usa topo como escolha deterministica.

Slam Gibson foi comparada ao Card List oficial: exige lider Supernovas, paga
5 DON restados, escolhe Character de custo 9 ou menos, envia ao topo ou fundo
da Life do dono face-down e mantem o Counter +3000. Teste de execucao prova
que custo 8 e movido, custo 10 permanece e a carta nao e duplicada na mao.

A auditoria adjacente corrigiu ainda um bug antigo de
`place_opp_char_to_opp_life`: o handler usava destino `hand` e depois tambem
inseria na Life, duplicando a mesma carta entre duas zonas. Agora move direto
campo -> Life. A rota de Counter reconhece a nova action como extra seguro.

Validacao: diff GANHOU 0 / PERDEU 0 / MUDOU 8; 2614 cartas; smokes curto e
amplo passaram. Auditor: **382 suspeitos** (386 -> 382).

Proximo suspeito real: OP13-002 Portgas.D.Ace. O segundo gatilho com
`[DON!! x1]`, dano recebido OU Character proprio de base power 6000+ K.O.,
e draw esta fundido incorretamente no primeiro `on_opp_attack`; exige censo
global de gatilhos compostos "When A or B" antes da correcao.

## 2026-07-15 (181) - Searchers por custo + topo do deck adversario: 394 -> 386

OP11-070 Charlotte Pudding revelou duas familias. O censo global encontrou
14 searchers com "cost N or more"; todos agora preservam `cost_gte` no
`add_to_hand`, e o engine aplica o limite na selecao. O Activate Main da
Pudding recuperou o requisito de DON anexado, `rest_self` e a consulta ao
topo adversario sem mover nem reordenar a carta.

A pontuacao perdida no CSV exigiu separar duas notacoes: `DON!! N:` continua
sendo `don_minus` (o sinal de menos sumiu da fonte, como OP11-062/OP14-078),
enquanto `DON!! N,` antes de `rest this Character` representa o requisito
`DON!! xN` em OP11-070/072/074. Nao foi feita conversao global equivocada.

O censo de "Choose a cost and reveal" encontrou 4 cartas: OP11-066, 071,
073 e 074. O parser agora guarda os efeitos apos "If the revealed card has
the chosen cost" em `on_match_steps`; K.O., draw/add DON, buff e rest nao
resolvem mais incondicionalmente. Em OP11-066, o "Then, add DON rested" fica
fora da condicao. O engine escolhe o custo modal do censo adversario antes
de consultar o topo, revela sem mover a carta e executa os steps aninhados
somente no acerto. Testes cobrem acerto, erro e o `Then` incondicional.

Validacao: diff GANHOU 0 / PERDEU 0 / MUDOU 25; 2614 cartas; smokes curto e
amplo passaram. Auditor: **386 suspeitos** (394 -> 386).

Proximo suspeito real, depois dos falsos positivos OP15-008, OP06-022 e
OP09-118: OP12-117 Slam Gibson, cujo `gain_life` perde o filtro de Character
com custo 9 ou menos e a escolha de topo OU fundo da Life.

## 2026-07-15 (180) - Diferenca de DON + familia de custo na mao: 405 -> 394

O acrescimo do usuario ampliou o censo de comparacoes relativas de DON. Foram
encontradas 25 cartas-base: 23 usam `proprio <= oponente` (familia ja coberta)
e 2 usam uma diferenca minima: OP06-072 Cosette e OP07-064 Sanji, ambas com
"at least 2 less". Nao ha hoje no banco texto relativo de DON com igualdade
estrita, maior ou maior-ou-igual; essas categorias nao foram inventadas sem
uma carta real.

O parser agora emite `don_fewer_than_opp_by_gte=2`; engine e verificadores de
condicao calculam `DON_oponente - DON_proprio >= N`. Cosette so ganha Blocker
com lider GERMA e diferenca suficiente. Sanji revelou um gap adjacente: a
reducao era parseada como efeito no campo, embora diga "this card in your
hand". Reducoes assinadas dessa familia agora usam `target=own_play_self`, e
`effective_hand_play_cost` recebe tambem o estado oponente para aplicar a
comparacao antes do planner e do pagamento real.

O censo adjacente auditou toda a familia de custo da propria carta na mao:
10 reducoes assinadas e 2 variantes sem sinal que DEFINEM o custo como 3
(OP11-023 e OP15-102). Foram estruturados e executados os filtros de Life,
Events/total no trash, power do Leader, nome do Leader + DON, Character
proprio por power+tipo ou power+nomes, Character oponente por base power e
quantidade total de cartas oponentes restadas. `set_play_cost` ficou distinto
de `debuff_cost`.

A varredura das novas gramaticas recuperou ainda gates reais em EB04-041,
OP08-059 e OP11-075 (DON no campo), OP08-028/OP08-033 (cartas oponentes
restadas) e OP10-003 (Character proprio com power+tipo). Power normal e base
power permanecem distintos; ST26-001 nao aceita buff sobre base 6000. Card List oficial confirmou
Sanji e as cartas da familia; o Q&A OP06 confirmou que Cosette perde Blocker
assim que deixa de estar 2 DON atras. Validacao: diff sem perda; 2614 cartas;
smokes curto e amplo passaram. Auditor: **394 suspeitos** (405 -> 394).
Snapshot final 0/0/0.

Proximo: retomar a fila reordenada em OP15-008/OP06-022 (falsos positivos) e
OP09-118 (falso positivo), seguindo para o primeiro suspeito real seguinte.

## 2026-07-15 (179) - Reducao de custo parametrizada e caminho unico: 408 -> 405

OP05-097 Mary Geoise revelou que `buff_cost` perdia o limite de custo original.
A familia global de "the next time you play" foi auditada e corrigida sem
hardcode por carta: OP02-025 Kin'emon preserva tipo Wano + `cost_gte=3`,
OP12-061 Rosinante recupera o Activate Main inteiro (DON -1, nome Trafalgar
Law, `cost_gte=4`, reducao 2) e Mary preserva Celestial Dragons +
`cost_gte=2`.

O engine nao possui mais a excecao nominal de Mary. `buff_cost` de Stage e
reducao pendente usam o mesmo step parseado, com filtros por tipo, nome e
custo original. Jogar carta inelegivel nao consome a reducao; ela expira ao
fim do turno. O Q&A oficial de OP12-061 confirmou ainda que Law jogado gratis
por outro efeito nao consome a reducao, comportamento coberto por teste.

Card List oficial confirmou os textos de Mary e Kin'emon; Card List/Q&A de
OP12 confirmou Rosinante. Validacao: diff GANHOU 0 / PERDEU 0 / MUDOU 3;
2614 cartas; smokes curto e amplo passaram. Auditor: **405 suspeitos**
(408 -> 405). Snapshot final 0/0/0.

Proximo: investigar OP07-064 Sanji (comparacao de DON "at least 2 less"),
fazendo primeiro o censo global de todas as variantes comparativas antes de
alterar parser e engine. OP15-008 e OP06-022 permanecem falsos positivos
confirmados do auditor numerico.

## 2026-07-15 (178) - Custo composto trash->fundo + escopo pos-custo: 410 -> 408

OP05-088 Mansherry e OP05-082 Shirahoshi revelaram a variante que faltava da
familia `place_from_trash_bottom_deck`: `rest this Character AND place N cards
from your trash...`. O suporte central ja cobria formas diretas, quantidade e
filtro; a regex composta agora preserva `rest_self` e `count=2` nas duas. O
engine faz preflight do material antes de qualquer mutacao, impedindo restar a
carta/DON parcialmente quando o trash nao paga o custo completo.

O censo encontrou 24 codigos-base: 20 custos normais, 3 substituicoes ja
separadas e EB04-044 como falso ausente causado por texto contaminado numa
arte alternativa (a carta-base Koby usa descarte da mao). Nenhuma regra foi
alterada com base nessa variante inconsistente.

O Q&A oficial de OP05-082 confirmou uma gramatica maior: em `[custos]: If C,
efeito`, C governa o beneficio, nao o pagamento. O parser agora move essas
condicoes para `steps[].conditions` em 131 cartas, preservando eventuais gates
antes do `:`. `_step_is_viable` consulta a condicao do step antes de pagar; a
regra permite pagar sem beneficio, mas a politica da IA continua corretamente
sem desperdiçar recursos quando nenhum step produz resultado.

Card List e Q&A oficiais confirmaram Shirahoshi e Mansherry. Validacao: diff
GANHOU 0 / PERDEU 0 / MUDOU 131 (mudanca estrutural de escopo, incluindo as 2
cartas com custo recuperado); 2614 cartas; smokes curto e amplo passaram.
Auditor: **408 suspeitos** (410 -> 408). Snapshot final 0/0/0.

Proximo: retomar a fila em OP05-097/OP07-064, depois de marcar OP15-008 e
OP06-022 como falsos positivos confirmados. Manter substituicoes de trash ao
fundo como subtipo separado, sem misturar com custos normais.

## 2026-07-15 (177) - Evento parametrizado de DON devolvido + estado ativo/restado

A observacao do usuario impediu um hardcode de EB02-035. O banco foi censado
por familia e agora possui um unico timing `when_don_returned`, parametrizado
por `return_count_gte` (1 ou 2 hoje), `owner_turn` e `by_own_effect`. Foram
recuperadas 18 cartas unicas: 14 com limiar 1 e 4 com limiar 2. A quantidade
vale por uma unica resolucao; devolver 1 DON duas vezes nao satisfaz "2 or
more". O dispatcher central percorre Leader, Characters e Stage, respeita
turno, origem e once-per-turn e recebe todas as devolucoes por
`_return_don_to_deck`.

A varredura revelou uma gramatica adjacente global: `add DON` antes ignorava
se o DON entrava ativo ou restado. As 87 mudancas do diff incluem os 18
timings acima e a preservacao de `rested=true` em toda a familia textual.
OP09-061 agora adiciona corretamente 1 DON ativo e 1 adicional restado.
P-077 agora adiciona DON antes de reativar um Stage roxo (antes apontava
incorretamente para Character). Thunder Bagua OP01-119 teve o teste antigo
corrigido: o Counter adiciona DON restado, conforme o texto real.

Card List oficial confirmou EB02-035, OP04-058 e P-077. Validacao: 2614
cartas; diff inicial GANHOU 0 / PERDEU 0 / MUDOU 87; smokes curto e amplo
passaram. Auditor: **410 suspeitos** (414 -> 410). Snapshot final 0/0/0.

Proximo da fila: OP15-008 continua no topo por um falso positivo do numeral
"1" no alvo textual; o primeiro gap material de alta prioridade deve ser
escolhido comparando texto cru, parse e Card List oficial.

## 2026-07-15 (176) - Comparacao global de DON no campo: 25 cartas

EB02-035 revelou duas lacunas independentes. Este lote corrigiu apenas a
condicao global `If the number of DON!! cards on your field is equal to or less
than the number on your opponent's field`: 25 cartas agora preservam
`don_on_field_lte_opp`, e os dois caminhos de execucao do engine bloqueiam o
efeito quando o jogador tem mais DON no campo que o oponente.

Card List oficial confirmou a redacao e a semantica em EB02-035, OP06-061 e
EB04-038. O teste de execucao cobre EB02-035 em 5 vs 4 DON (nao compra) e 4 vs
4 DON (compra), alem de amostras de OP06, OP07 e OP12.

Validacao: diff GANHOU 0 / PERDEU 0 / MUDOU 25, todas mudancas restritas a
adicionar a condicao; 2614 cartas; smokes curto e amplo passaram. Auditor:
**414 suspeitos** (sem queda, pois EB02-035 ainda conserva o numero 2 abaixo).

Proximo subtipo obrigatorio: modelar o gatilho de EB02-035 `When 2 or more
DON!! cards ... are returned to your DON!! deck`. Ele exige rastreamento do
total de DON devolvido durante o turno; nao confundir com a condicao comparativa
ja corrigida neste lote.

## 2026-07-15 (175) - Rush: Character textual e condicional: fila 415 -> 414

EB02-019 revelou que `can attack Characters on the turn in which it is played`
nao e Rush completo: e Rush: Character e nunca permite atacar o Leader nesse
turno. Card List oficial confirmou a distincao. Busca global corrigiu 9 cartas:
- EB02-019: `gain_rush_character` condicionado a `opp_chars_gte=2`.
- OP07-032, OP11-027 e OP14-090: mesmos fraseados condicionais/individuais,
  antes tratados como Rush completo.
- OP04-096 e OP11-001: auras por tipo agora concedem Rush: Character aos
  Characters correspondentes, nao ao Stage/Leader fonte.
- P-091: Activate Main inteiro recuperado, com rest_self e selecao Neptunian.
- OP07-073: nova condicao global `opp_chars_gte=3` recuperada.
- OP07-029: removido falso custo `rest_self` vindo do reminder de Blocker;
  a substituicao ja carrega o custo real de restar Character oponente.

O aplicador central de passivas passou a incluir Stage e abrir corretamente a
janela `rush_character_only_this_turn` para cartas recem-jogadas. Testes cobrem
gate 1 vs 2 Characters, proibicao de Rush completo, aura Corrida Coliseum e
Activate Main de P-091.

Validacao: diff GANHOU 0 / PERDEU 0 / MUDOU 9, todas conferidas; 2614 cartas;
smokes curto e amplo passaram; snapshot final 0/0/0. Auditor: **414 suspeitos**.

Proximo da fila: EB02-035, evento `When 2 or more DON!! cards ... are returned`
e condicao comparativa entre DON dos dois campos.

## 2026-07-15 (174) - OP10-022 + custo global de auto-bounce: fila 416 -> 415

OP10-022 foi fechado como subtipo da familia de jogar o topo da Life. Agora
preserva DON x1/once per turn, condicao `total_chars_cost_gte=5`, custo real
`return_own_character_to_hand` e `play_from_life_top` filtrado por Supernovas
e custo<=5. O custo nao e pago quando a condicao falha nem quando o topo da
Life e inelegivel; teste de execucao cobre os tres cenarios.

A busca global do novo custo encontrou 5 cartas adicionais: OP07-055,
OP09-030, OP13-031, OP13-059 e ST17-002. Os textos foram conferidos: em todos,
`You may return 1 of your Characters ...:` e custo antes do beneficio. O
parser agora representa isso genericamente, em vez de deixar gratuito.

Validacao: diff GANHOU 0 / PERDEU 0 / MUDOU 6, todas conferidas;
`gerar_dbs.py` 2614; smoke curto e amplo passaram. Auditor: **415 suspeitos**.

Proximo confirmado da fila: EB02-019, permissao condicional de atacar apenas
Characters no turno de entrada. Antes de corrigir, validar Q&A e buscar todas
as variantes de Rush parcial/condicional.

## 2026-07-15 (173) - Trio ST13 joga topo da Life: fila 419 -> 416

Varredura da familia de ST13-010 encontrou o trio de fraseado identico
ST13-007/010/014 e a variante mais complexa OP10-022. Card List oficial
confirmou nome, custo 5, play do topo da Life e buff subordinado a `If you do`.

O trio agora usa `play_from_life_top` com `filter_name`, `cost_eq=5` e
`on_success_steps`. O executor mantem a carta na Life quando nome/custo falham;
quando passam, joga gratuitamente exatamente o topo revelado e somente entao
aplica +2000 ao Leader. O antigo buff solto foi removido para nao ativar sem
play. Testes reais cobrem filtro falho e sucesso.

Validacao: diff inicial GANHOU 0 / PERDEU 0 / MUDOU 3; `gerar_dbs.py` 2614;
smoke curto e amplo passaram. Auditor: **416 suspeitos**.

Pendente obrigatorio da mesma familia: OP10-022, que combina play do topo da
Life por tipo/custo<=5 com DON x1, condicao `total cost of your Characters >=5`
e custo opcional de devolver 1 Character proprio a mao. Nao tratar a
simplificacao atual (bounce como step e play ausente) como correta.

## 2026-07-15 (172) - Familia descarte da mao adversaria: 5 cartas; fila 424 -> 419

OP03-078 revelou duas variantes globais ausentes. A busca no banco inteiro e
a comparacao com Card List/Q&A oficial produziram 5 correcoes:
- OP03-078 e OP06-097: variante imperativa `trash N cards from your
  opponent's hand` agora gera `opp_trash_from_hand` com
  `chosen_by=effect_owner_blind`.
- OP09-111 e OP12-085: `and your opponent has N or more cards...` agora
  preserva `opp_hand_gte`, alem da outra condicao do bloco.
- ST10-010: On Play inteiro recuperado, incluindo DON!! -1, gate de 7 cartas
  e descarte cego de 2.

Distincao mecanica confirmada pelo Q&A de OP03-078: em `your opponent
trashes`, o dono da mao escolhe o descarte; no imperativo de Issho, o
controlador do efeito escolhe cartas face-down e nao conhece os valores.
Por isso o engine usa escolha aleatoria somente quando
`chosen_by=effect_owner_blind`; a variante em que o oponente escolhe continua
preservando as cartas de maior valor dele.

Validacao: diff inicial GANHOU 0 / PERDEU 0 / MUDOU 5, todas conferidas;
`gerar_dbs.py` sincronizou 2614 cartas; `smoke_fast.py` e `smoke_test.py`
passaram; teste de execucao confirmou que OP03-078 nao descarta com 5 cartas
e descarta exatamente 2 com 6. Auditor recalculado: **419 suspeitos**.

Proximo da fila: ST13-010. Antes de corrigir, buscar globalmente a familia
`Reveal ... Life; If that card is [nome] with cost N, play` e variantes.

## 2026-07-15 (171) - Familia 0 Life: 4 gates corrigidos; fila 428 -> 424

Varredura global de `If you have 0 Life cards` encontrou 7 cartas unicas.
Este lote corrigiu genericamente as 4 cujo efeito ja era estruturado e faltava
somente o gate: EB04-051, OP06-115, OP10-115 e ST13-018. `life_lte=0` agora
respeita o scoping: em `Then, if`, somente o step posterior recebe a condicao;
o debuff/buff anterior continua incondicional. Em OP06-115 o Trigger inteiro
recebe o gate. Teste de execucao confirmou OP10-115 com 1 Life (buff sem draw)
e 0 Life (buff + draw).

Validacao: `diff_parser.py` antes do snapshot = GANHOU 0 / PERDEU 0 / MUDOU 4;
as 4 mudancas foram conferidas. `gerar_dbs.py` sincronizou 2614 cartas;
`smoke_fast.py` e `smoke_test.py` passaram. Auditor recalculado: **424
suspeitos** (queda real de 4).

Subfamilias descobertas e mantidas explicitamente na fila, sem correcao
parcial mascarada:
- EB04-056 combina `If you have [Jewelry Bonney]` + 0 Life. A familia global
  `If you have [nome]` tem pelo menos 14 cartas unicas e variantes de campo,
  trash, multiplos nomes e requisitos de power; deve ser tratada inteira.
- P-039 tem buff passivo condicionado a 0 Life ainda nao parseado.
- ST13-003 tem um Activate: Main inteiro ainda nao parseado.
- OP06-115 ainda perde o step posterior `Then, trash 1 card from your hand`
  no Trigger. Buscar globalmente a familia de descarte posterior (nao custo)
  antes de corrigir.

Proximo candidato de alto uso na fila recalculada: OP03-078 (On Play ausente),
sem esquecer que as tres subfamilias acima continuam abertas.

## 2026-07-15 (170) - Regra obrigatoria da varredura: toda descoberta nova exige busca global

**Instrucao explicita do usuario para a investigacao dos 428 suspeitos:** ao
encontrar qualquer nova gramatica, mecanica, filtro ou condicao, NAO corrigir
somente a carta que revelou o gap. Antes de fechar o item, percorrer o banco
inteiro procurando todas as cartas com o mesmo padrao e variantes de fraseado,
comparar cada familia com Card List/Q&A oficial e corrigir a causa raiz comum.

**Criterio de conclusao de cada descoberta:**
1. Carta reveladora comparada: texto local x JSON estruturado x fonte oficial.
2. Busca global em `cards_rows.csv` por fraseado exato e variantes semanticas.
3. Lista completa da familia revisada, incluindo cartas sem numero perdido
   (o auditor numerico nao encontra condicoes como `any`).
4. Parser corrigido de forma generica; sem hardcode por card ID.
5. Engine/handler implementado ou reutilizado e testado por execucao real.
6. `diff_parser.py` com `PERDEU=0`; toda carta em `MUDOU` conferida.
7. `gerar_dbs.py`, snapshot novo, diff final 0/0/0, smoke curto e amplo
   proporcionais ao risco.
8. Rerodar o auditor e registrar a nova contagem no topo do HANDOFF.

Contagem correta no inicio desta etapa: **428 suspeitos** (433 antes da
retomada; -4 condicoes de vida encadeadas; -1 Hina). Proximo confirmado:
OP06-115, mas a correcao deve começar pela busca global da familia `0 Life`.

## 2026-07-15 (169) - Decisao arquitetural: eliminar fallback de efeitos somente apos fechar a auditoria

**Decisao explicita do usuario — NAO ESQUECER:** o objetivo final e o engine
ter um unico caminho estruturado de efeitos. Hoje
`decision_engine.get_card_effects()` ainda complementa lacunas de
`card_effects_db` lendo texto de `card_analysis_db`. Esse fallback pode
mascarar falhas do parser, mas remove-lo agora quebraria cartas que ainda
dependem dele.

**Ordem obrigatoria:**
1. Corrigir os parses confirmados por texto oficial/Card List/Q&A.
2. Rerodar `audit_parser_coverage.py` e reduzir/revalidar a fila atual de 428
   suspeitos.
3. Auditar programaticamente quais cartas ainda mudam quando o fallback de
   `card_analysis_db` esta ligado versus desligado.
4. Corrigir no parser estruturado todas as dependencias reais encontradas.
5. Remover o fallback somente quando essa comparacao der zero dependencias e
   as regressoes curta/ampla passarem.
6. Estado final: `card_effects_db` como unico caminho de efeitos consumido
   pelo engine; `card_analysis_db` permanece banco derivado para analise/API,
   nao reparador de efeitos em runtime.

**Proibido:** remover o fallback antes dos passos 1-4, declarar o banco
completo apenas porque o auditor numerico chegou a zero, ou criar outro
arquivo paralelo de tracking. A fila ativa permanece neste `HANDOFF.md` e o
auditor continua sendo apenas ferramenta diagnostica.

## 2026-07-15 (168) - Codex - auditor rerodado e fila oficial reconstruida (428 suspeitos)

`audit_parser_coverage.py --show 40` rerodado depois dos tres clusters desta
sessao: fila caiu de 433 para 428. A classificacao foi mantida neste bloco do
HANDOFF, sem criar outro arquivo de tracking/fonte paralela: CONFIRMADO ERRO,
SUSPEITO FORTE, PROVAVEL FALSO POSITIVO e REVISAR ESCOPO.

Mudanca de metodo exigida pelo usuario: texto de `cards_rows.csv` x JSON serve
apenas para localizar suspeito. Confirmacao exige Card List oficial da Bandai
e, quando houver ambiguidade, Q&A oficial. Primeira rodada oficial confirmou
3 erros: OP06-115 (gate 0 Life ausente), OP03-078 (On Play inteiro ausente) e
EB02-019 (permissao condicional de atacar apenas Characters virou Rush amplo e
incondicional). ST13-010 e demais continuam suspeitos, nao confirmados, ate
consulta oficial.

Proxima acao: corrigir OP06-115 primeiro, depois OP03-078; validar semantica de
EB02-019 pelo Q&A antes de alterar.

**Limpeza arquitetural pedida pelo usuario:** o arquivo temporariamente criado
`scriptis_da_ia/PARSER_AUDIT_MAP.md` foi removido no commit seguinte para nao
duplicar a fila do `HANDOFF.md`. `audit_parser_coverage.py` permanece apenas
como ferramenta que calcula o estado atual; nao e importado pelo engine. Achado
adicional a auditar separadamente: `decision_engine.get_card_effects()` le
`card_effects_db` e possui fallback por texto do `card_analysis_db`; isso pode
mascarar gaps do parser estruturado e deve ser consolidado depois da varredura,
sem misturar essa mudanca arquitetural com a correcao imediata de OP06-115.

## 2026-07-15 (167) - Codex - OP02-110 Hina: On Block indireto com "during this turn"

**Suspeito seguinte da varredura confirmado como bug real.** Entre as 14
cartas unicas com `[On Block]`, 13 ja tinham entry estruturada; apenas
OP02-110 Hina continha somente `keyword_blocker`. Texto: `Select up to 1 ...
cost of 6 or less. The selected Character cannot attack during this turn.`

**Causa raiz:** `parse_lock_attack` ja suportava a variante indireta
`Select... The selected Character cannot attack`, mas exigia duracao iniciada
por `until`. A variante direta ja aceitava `during this turn`; a indireta nao.
Generalizado o mesmo tratamento de duracao na variante indireta. Nenhuma
mecanica nova no engine: reutiliza `lock_opp_character_attack` e
`cannot_attack_until` existentes.

**Validado:** diff inicial `PERDEU=0`, `MUDOU=1` (somente OP02-110). O JSON
ganhou `on_block` com `count=1`, `cost_lte=6` e
`duration=until_opp_turn_end`. Teste dirigido executa o step: trava o alvo de
custo 6 e preserva o de custo 7. `smoke_fast.py` verde. Snapshot atualizado,
diff final 0/0/0, `py_compile` verde e `smoke_test.py` amplo passou.

**Fonte oficial conferida depois do alerta do usuario:** Card List da Bandai
para OP02-110 confirma literalmente o mesmo `[On Block]`, alvo `up to 1`,
`cost of 6 or less` e `cannot attack during this turn`. O Q&A oficial OP-02
confirma ainda: (1) alvo com Rush nao pode atacar; (2) alvo rested que depois
fica active continua sem poder atacar; (3) se o alvo ja estava atacando, o
ataque atual continua, pois ja foi declarado. Isso coincide com
`cannot_attack_until`: bloqueia novas declaracoes, sem cancelar a batalha em
andamento. Regra de metodo daqui em diante: CSV x parse localiza o suspeito,
mas a correcao so e considerada fiel depois de conferir Card List/Q&A oficial
quando disponivel.

## 2026-07-15 (166) - Codex - clustering: condicao de vida do oponente apos "and" (4 cartas)

**Proximo suspeito de uso real revisado:** ST28-003 tinha texto `[Trigger] If
your Leader has ... and your opponent has 3 or less Life cards, play this
card`, mas o JSON guardava apenas `leader_type`; `opp_life_lte` sumia e o
Trigger podia jogar a carta com 4+ vidas do oponente.

**Causa raiz compartilhada:** `parse_conditions` aceitava somente `if your
opponent has N or less/more Life`, nao a variante encadeada `and your opponent
has ...`. Generalizar o prefixo para `(?:if|and)` corrigiu exatamente 4 cartas:
ST28-003 e OP14-108 (`opp_life_lte: 3`), OP10-104 e ST28-001
(`opp_life_gte: 3`). Texto cru e JSON das quatro foram conferidos; todas
preservam tambem o primeiro requisito (`leader_type` ou `leader_multicolor`).

**Validado:** diff inicial `PERDEU=0`, `MUDOU=4`; smoke_fast verde com testes
de parse das quatro cartas e execucao real de ST28-003 bloqueado em 4
vidas/liberado em 3. Snapshot atualizado, diff final 0/0/0, `py_compile` verde
e `smoke_test.py` amplo passou integralmente.

## 2026-07-15 (165) - Codex - varredura ampla: condicao "any DON!! cards given" recuperada (6 cartas OP13)

**Retomada direta do clustering do bloco 164.** A familia OP13-061/062/
063/066/076/077 continha a mesma condicao: "If you have any DON!! cards
given". As acoes estavam presentes no JSON, mas a condicao inteira era
descartada; por isso On Play/Main ativavam mesmo sem nenhum DON anexado.

**Causa raiz:** `parse_conditions` nao tinha uma representacao para "algum
DON anexado". Adicionado `has_don_attached=True`, distinto de
`don_available`, `don_rested` e `don_on_field`: so satisfaz quando existe ao
menos 1 DON anexado ao Leader ou a um Character proprio. A condicao foi
ligada nos 2 checadores (`EffectExecutor._check_conditions` e
`DecisionEngine._effect_conditions_met`) para execucao e planejamento
concordarem.

**Limite descoberto no auditor:** `audit_parser_coverage.py` continua em 433
suspeitos porque esta condicao usa a palavra "any", sem numero perdido. O
auditor numerico nao detecta esta classe de gap; o cluster veio da comparacao
manual texto cru x JSON registrada no bloco 164. Futuras rodadas precisam
combinar clustering numerico com busca por clausulas condicionais ausentes.

**Validado:** `diff_parser.py` PERDEU=0/MUDOU=6 antes do snapshot (exatamente
as 6 cartas), `gerar_dbs.py` sincronizou 2614 cartas, snapshot atualizado e
diff final 0/0/0. `smoke_fast.py` passou com 105 checks, incluindo: DON apenas
na cost area NAO satisfaz; DON anexado ao Leader ou Character satisfaz.
`smoke_test.py` amplo passou integralmente. `py_compile` verde.

**Proxima sessao:** continuar a varredura por agrupamentos. Candidatos de uso
real que apareceram no topo do auditor atual e ainda exigem comparacao manual:
ST28-003 (condicao de vida do oponente), OP02-110 (`On Block`), OP03-078
(`On Play`), ST13-010 (reveal/play da Life), OP05-088 (custo de devolver trash
ao deck) e OP11-070 (`Activate: Main`). Nao assumir que todos sao bugs sem
comparar texto e JSON.

## 2026-07-15 (164) - Claude - OP15-008 Krieg: condicao just_played + debuff escalado por DON do proprio alvo (ULTIMO item do lote de 10 -- LOTE CONCLUIDO)

**Fecha o lote de 10 cartas revisadas manualmente pelo usuario** (blocos
158-164, sessao de 15/07). OP15-008 Krieg `[Activate: Main]`: "If this
Character was played on this turn, give all of your opponent's
Characters -1000 power during this turn for every DON!! card given to
that Character." 2 bugs:

**1) `just_played` (condicao nova, 4 cartas):** "if this Character was
played this turn" nunca existia como tipo de condicao -- checa
`card.just_played` (campo ja existente no engine, so nunca consumido por
`_check_conditions`). Sem isso, `activate_main` disparava em QUALQUER
turno, nao so no turno em que a carta foi jogada. Fechou tambem
EB03-013, OP08-079, ST19-003 (mesmo padrao textual exato). Adicionado
nos 2 checadores (`_check_conditions` + `_effect_conditions_met`).

**2) `per_don_attached` (escalonamento novo em `debuff_power`, 1 carta):**
"-1000 power ... for every DON!! card given to THAT Character" nao e um
-1000 fixo pra todo o campo do oponente -- e -1000 MULTIPLICADO pelo
proprio `don_attached` de CADA alvo, individualmente (um character com 3
DON leva -3000, um sem DON nenhum nao leva nada). Antes disparava um
-1000 uniforme pra todo mundo, ignorando quanto DON cada um tinha
(mecanica de "quanto mais forte fica o alvo com DON, mais ele apanha" --
sinergia com o `on_play` do mesmo Krieg, que empilha ate 3 DON num unico
character do oponente antes desse `activate_main` rodar). Regex de
deteccao usa uma janela propria de 80 chars apos "power" (a clausula
"for every DON..." vem DEPOIS de "during this turn", passando dos 40
chars do `JANELA_DEPOIS` padrao usado pelo resto de `parse_power_buff`).

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=4 (todas conferidas
contra `card_text` cru). 1 teste dirigido novo com EXECUCAO real
(`test_krieg_just_played_e_debuff_escalado_por_don`): confirma que um
alvo com 2 DON anexado leva -2000, um com 1 DON leva -1000, um sem DON
nao leva debuff nenhum -- prova a escala POR ALVO, nao um valor global.
`smoke_fast.py` (102 checks) + `smoke_test.py` amplo, ambos verdes.

**LOTE DE 10 DO USUARIO: 100% CONCLUIDO** (blocos 158-164): OP05-040,
OP05-091, OP06-022 (ja estava correto), OP08-044/Kingdew, OP09-098,
OP10-098, OP15-008, OP16-108, OP16-116, ST12-003 -- todos os itens
anotados manualmente pelo usuario foram corrigidos ou confirmados. Gaps
notados ao longo do caminho, fora do lote original, para uma proxima
varredura: OP13-061/062/063/066/076/077 (`if you have any DON!! cards
given` -- condicao de DON anexado na PROPRIA carta, tipo ainda nao
suportado, ~6 cartas).

**Proxima sessao:** retomar a varredura ampla por clustering nos
suspeitos restantes de `audit_parser_coverage.py` -- instrucao
permanente do usuario ("precisamos fazer uma varredura"), nao e tarefa
pontual encerrada com este lote.

## 2026-07-15 (163) - Claude - OP10-098 Liberation: condicao relativa de board + KO duplo + trigger "1 de cada" (item 6/6, lote de 10 CONCLUIDO -- so falta Krieg)

**Continuacao do lote de 10 do usuario.** OP10-098: "[Main] If the number
of your Characters is at least 2 less than the number of your opponent's
Characters, K.O. up to 1 of your opponent's Characters with a base cost
of 6 or less and up to 1 of your opponent's Characters with a base cost
of 4 or less. [Trigger] Negate the effect of up to 1 of EACH of your
opponent's Leader and Character cards during this turn." 3 bugs
distintos na mesma carta:

**1) Condicao de comparacao RELATIVA entre boards (nova, `chars_fewer_than_opp_by_gte`):**
toda a familia `chars_gte`/`chars_lte` so comparava contra um numero
FIXO -- nunca existia "meu board tem N a menos que o do oponente".
Tambem cobre a variante mais simples "if you have less/fewer Characters
than your opponent" (sem "at least N", so precisa de qualquer diferenca
>=1) -- fechou EB04-059 de brinde (achado ao investigar o proximo bug).
Adicionada nos 2 checadores (`_check_conditions` E `_effect_conditions_met`,
mesma licao recorrente da sessao).

**2) 2a clausula de KO com "and" sem repetir o verbo (6 cartas fechadas
de uma vez):** `parse_ko` ja usava `finditer` pra pegar multiplas
clausulas "K.O. up to N ... Character...", mas cada match EXIGIA o verbo
K.O./trash no INICIO -- a 2a clausula ("and up to 1 of your opponent's
Characters with a base cost of 4 or less") e uma CONTINUACAO implicita,
sem repetir "K.O.". Adicionado um `re.match` logo apos cada match
principal pra capturar essa continuacao (herda o mesmo verbo/action do
1o match), suportando tanto filtro de custo quanto de power. Alem de
OP10-098: EB04-059, OP01-096, OP03-018, OP05-093, OP07-118, OP13-077 --
todas essas cartas ja tinham esse EXATO padrao de 2 clausulas de KO
encadeadas e so a 1a sobrevivia no parse ate agora.

**3) `[Trigger]` "1 de CADA" (novo target, distinto de opp_leader_or_character):**
"negate the effect of up to N of EACH of your opponent's Leader and
Character cards" significa negar 1 Leader E 1 Character (2 negacoes
independentes), nao uma escolha entre um ou outro (que e o que
`opp_leader_or_character` ja modelava). Emite 2 steps `negate_effect`
separados (`opp_leader` + `opp_character`).

**Gaps notados, fora de escopo desta rodada:** EB04-059 e OP13-077
tinham SUA PROPRIA condicao adicional alem da que foi corrigida aqui
(EB04-059: "you may turn 1 Life card face-up" como custo opcional, ja
capturado; OP13-077: "if you have any DON!! cards given" -- condicao de
DON anexado na PROPRIA carta, tipo novo ainda nao suportado, 6 cartas
reais no banco: OP13-061/062/063/066/076/077). Registrado aqui pra nao
esquecer numa proxima varredura.

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=7 (todas conferidas
contra `card_text` cru -- nenhuma regressao, todas ganhos reais). 1
teste dirigido novo com EXECUCAO real
(`test_liberation_condicao_relativa_ko_duplo_e_trigger_1_de_cada`):
confirma que os 2 alvos de KO (custo<=6 e custo<=4) sao aplicados de
verdade, poupando o alvo fora da faixa. `smoke_fast.py` (98 checks) +
`smoke_test.py` amplo, ambos verdes.

**Lote de 10 do usuario: 5/6 itens fechados nesta sessao** (OP09-098,
OP05-091, OP05-040, OP16-116, OP16-108, OP10-098) mais os 3 primeiros do
bloco 158 (don_on_field_gte, chars_lte, reveal_from_hand) = TODOS menos
OP15-008 Krieg (condicao `just_played` + debuff dinamico por DON do
proprio alvo -- mecanica nova, fica pra proxima sessao). OP06-022 Yamato
ja estava correto (confirmado no bloco 158, sem acao necessaria).

## 2026-07-15 (162) - Claude - OP16-108 Shiryu: bloco on_play inteiro faltando por exclusao generica demais em parse_life (item 5/6 do lote de 10)

**Continuacao do lote de 10 do usuario.** OP16-108: "[On Play] You may
trash 1 card from your hand: Add up to 1 {Blackbeard Pirates} type card
with a cost of 6 or less from your trash to the top of your Life cards
face-up." O bloco `on_play` inteiro estava ausente (so o `[Trigger]`
sobrevivia).

**Causa raiz:** `parse_life` ja tinha `source_from()` reconhecendo "from
your trash" -> `source: 'trash'` para `gain_life` havia tempo, mas o
bloco geral que monta o step (`if m and 'trash' not in m.group(0)`)
EXCLUIA qualquer match contendo a palavra 'trash' -- inclusive quando
'trash' era exatamente a FONTE legitima do efeito, nao uma colisao com
outro padrao. A exclusao so precisava cobrir a variante "hand or
trash"/"trash or hand" (ja tratada por um bloco especifico ANTERIOR,
`m_hand_trash_life`, pra nao duplicar o step) -- refinada pra isso
especificamente. So 1 carta no banco bate esse padrao exato hoje
(`source: trash` puro, nao a variante hand-or-trash), mas o bug de
design bloqueava qualquer carta futura igual.

**Faltava tambem:** `gain_life` com `source: trash` nunca tinha filtro
de tipo/custo (so `own_field` tinha `power_eq`) -- adicionado
`filter_type`/`cost_lte` no parser e consumidos no executor via
`eligible_cards`/`choose_highest_board_value` (mesmo padrao ja usado por
`add_from_trash`), no lugar do antigo `me.trash.pop(0)` sem filtro
nenhum.

**Validado:** `diff_parser.py` PERDEU=0, mudanca isolada em OP16-108. 1
teste dirigido novo com EXECUCAO real (`test_shiryu_add_from_trash_to_life_com_filtro`):
confirma que o custo opcional e o step novo parseiam certo, e que SO o
alvo dentro do filtro (tipo Blackbeard Pirates + custo<=6) vai pra vida
face-up, alvo caro e alvo de tipo errado ficam no trash. Testa o step
via `_execute_step` direto (bypassa `_worth_paying_optional_costs`,
decisao estrategica separada ja coberta por outros testes -- aqui o
alvo era validar so o mecanismo fonte=trash+filtros). `smoke_fast.py`
(93 checks) + `smoke_test.py` amplo, ambos verdes.

**Ainda pendente do lote de 10:** OP10-098 Liberation (condicao de
comparacao relativa de board + segundo alvo de KO + bloco `[Trigger]`
inteiro), OP15-008 Krieg (condicao `just_played` + debuff dinamico por
DON do proprio alvo) -- os 2 itens mais complexos do lote, ficam pra
proxima sessao.

## 2026-07-15 (161) - Claude - OP16-116 Zehahahahaha: segunda clausula era so um fraseado alternativo de deal_damage (8 cartas fechadas de uma vez, item 4/6 do lote de 10)

**Continuacao do lote de 10 do usuario.** OP16-116: "...play up to 1
[Marshall.D.Teach] from your hand. Then, add up to 1 card from the top
of your opponent's Life cards to the owner's hand." A segunda clausula
estava totalmente ausente do parse.

**Insight que evitou mecanismo novo:** vida SEMPRE pertence ao proprio
dono -- "to the owner's hand" quando a vida e do OPONENTE significa
literalmente "vai pra mao do proprio oponente", que e EXATAMENTE a regra
que `deal_damage` ja executa (pop do topo da vida do oponente + trigger
check). E so um segundo idioma textual pra descrever dano direto, nao
uma mecanica distinta -- reaproveitado o action existente em vez de
inventar um novo. Regex nova em `parse_life` ancorada em "from the top of
your opponent's life cards to the owner's hand", mapeando pra
`deal_damage` com `up_to`/`count` extraidos via `qty_in`/`up_to_in` (mesmos
helpers ja usados no resto da funcao).

**Bonus (nao intencional, mas correto):** EB03-053 tinha uma condicao
`opp_life_gte: 3` incorretamente aplicada ao ENTRY inteiro (contaminando
o `give_don` incondicional do mesmo bloco) -- ao virar 2 steps
distintos, a condicao "Then, if opponent has 3+ life..." ficou
corretamente escopada SO no novo step de `deal_damage`, liberando o
`give_don` de uma trava que nunca deveria ter tido.

**8 cartas fechadas:** OP16-116 (Zehahahahaha), OP16-107, EB03-053,
EB04-054, OP14-041, OP14-112 e mais 2 duplicatas de linha no CSV.
**Gap pre-existente notado, fora de escopo desta rodada:** OP14-041 tem
2 gatilhos DISTINTOS no mesmo texto cru ("[Opponent's Turn] When you
play a Character..." e "[DON!!x1][Once Per Turn] When one of your
{Amazon Lily}/{Kuja Pirates} Character... is K.O.'d...") que o parser ja
colapsava incorretamente num unico bloco `opp_turn` ANTES desta sessao
(bug de fusao de tags adjacentes, nao meu fix) -- meu fix so capturou
corretamente o efeito que faltava dentro do bloco ja mal-agrupado, nao
corrigiu o agrupamento. Registrado aqui pra nao ser esquecido numa
proxima varredura.

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=6 (todas conferidas
contra `card_text` cru). 1 teste dirigido novo com EXECUCAO real
(`test_zehahahahaha_segunda_clausula_dano_direto`): confirma que Teach e
jogado da mao E a vida do topo do oponente vai pra mao DELE (nao da
minha) apos o efeito. `smoke_fast.py` (89 checks) + `smoke_test.py`
amplo, ambos verdes sem nenhum ajuste necessario.

**Ainda pendente do lote de 10:** OP16-108 Shiryu (bloco `on_play`
inteiro), OP10-098 Liberation (condicao de comparacao relativa de board
+ segundo alvo de KO + bloco `[Trigger]` inteiro), OP15-008 Krieg
(condicao `just_played` + debuff dinamico por DON do proprio alvo).

## 2026-07-15 (160) - Claude - OP05-040 Birdcage: passiva de Stage simetrica "nao ficar ativo" (item 3/6 do lote de 10)

**Continuacao do lote de 10 do usuario.** OP05-040 (Birdcage, Stage) so
tinha o KO de fim de turno parseado; a clausula inicial inteira estava
ausente: "If your Leader is [Donquixote Doflamingo], all Characters with
a cost of 5 or less do not become active in your and your opponent's
Refresh Phases."

**Por que nao caia em nenhum mecanismo existente:** o motor ja tinha uma
familia de travas "nao ficar ativo no Refresh" (`lock_opp_character_refresh`,
`lock_self_character_refresh`), mas todas elas: (1) so reconheciam o
fraseado "will not become active" (efeito de UM disparo so, geralmente
custo de uma habilidade forte) -- Birdcage usa "do not become active"
(passiva persistente, sempre ativa enquanto a Stage estiver em campo);
(2) so afetavam UM lado (oponente OU self) -- Birdcage afeta os DOIS
jogadores ao mesmo tempo, simetricamente. Mecanismo novo:
`lock_both_character_refresh` (novo action, `cost_lte`), condicionado a
`leader_is` (ja existia como tipo de condicao, so nao tinha uso aqui).

**Mudanca estrutural em `refresh_phase`:** precisou passar a receber
`opp` (antes so recebia `p`, o jogador sendo refrescado) porque a fonte
do lock (a Stage) pode estar no campo de QUALQUER um dos 2 jogadores, e o
efeito se aplica ao `p` sendo processado independente de quem possui a
Stage. Atualizados os 3 call sites (`_play_turn_greedy`, `play_turn`,
`replay_optcg.py`). Verifica os dois `field_stage` (de `p` e `opp`) antes
de decidir o `cost_lte` da trava, e a condicao `leader_is` e checada
contra o LIDER DO DONO da Stage (nao do `p` sendo refrescado). Distinto
de `frozen_next_refresh` (freeze 1x, consumido): esta trava e
PERSISTENTE, nunca "gasta" -- se reavalia a cada refresh_phase.

**Validado:** `diff_parser.py` PERDEU=0, mudanca isolada em OP05-040. 1
teste dirigido novo com EXECUCAO real
(`test_birdcage_trava_refresh_simetrica_cost_lte`): confirma que
personagens custo<=5 do DONO da Birdcage continuam rested apos o proprio
refresh, custo>5 ativa normal, E que personagens custo<=5 do OPONENTE
tambem ficam presos quando o `refresh_phase` dele roda (prova a simetria
via 2 chamadas separadas, 1 pra cada lado). `smoke_fast.py` (84 checks) +
`smoke_test.py` amplo, ambos verdes (a mudanca de assinatura de
`refresh_phase` nao quebrou nenhum teste existente).

**Ainda pendente do lote de 10:** OP16-116 (segunda clausula de roubo de
carta da vida), OP16-108 Shiryu (bloco `on_play` inteiro), OP10-098
Liberation (condicao de comparacao relativa de board + segundo alvo de
KO + bloco `[Trigger]` inteiro), OP15-008 Krieg (condicao `just_played`
+ debuff dinamico por DON do proprio alvo).

## 2026-07-15 (159) - Claude - OP05-091 Rebecca: add_from_trash tinha exclude invertido pra INCLUDE (18 cartas afetadas), faixa de custo nunca capturada (6), tipo entre chaves nunca capturado (4), ordem de step trocada

**Continuacao direta do lote de 10 do usuario (item 2/6 pendente do bloco
158).** `parse_add_from_trash` acumulava 3 bugs de causa raiz distintos,
todos expostos pela mesma carta (OP05-091):

**"other than [X]" virava INCLUDE, nao EXCLUDE (achado mais grave, 10
cartas reais):** `filter_name` era preenchido com QUALQUER `[Nome]` entre
colchetes na descricao, sem distinguir "other than [X]" (exclui X) de
"[X]" puro (so aceita X). Pra OP05-091 isso significava que o efeito so
aceitava recuperar OUTRAS COPIAS DE REBECCA do trash -- o oposto exato do
texto real ("cost 3 to 7 OTHER THAN [Rebecca]"). Corrigido: `other than
[X]` checado primeiro -> `exclude_name` (campo que `eligible_cards` ja
suportava mas o parser nunca usava aqui); sem esse prefixo, mantem
`filter_name` como antes. OP01-005 (Uta), OP01-015/OP15-085 (Tony Tony
Chopper), OP06-090 (Dr. Hogback), OP16-115 (Black Vortex) e mais 5.

**Faixa de custo "N to M" nunca era capturada (6 cartas):** so existia
`cost of N or less`; "cost of 3 to 7" (Rebecca) e similares ficavam SEM
NENHUM limite de custo -- o efeito podia recuperar qualquer coisa do
trash, custo 10 incluso. Adicionado `cost_gte`/`cost_lte` como par
quando bate a faixa.

**Cor nunca era capturada (16 cartas):** "add up to 1 BLACK Character
card..." ignorava a cor completamente. Adicionado (primeira palavra da
descricao, quando bate uma das 6 cores).

**Tipo entre CHAVES nunca era capturado (4 cartas):** so aspas
("X" type) eram aceitas; `{Land of Wano} type`/`{Straw Hat Crew} type`
etc ficavam sem filtro de arquetipo nenhum (OP15-085, OP16-097 e mais 2).

**Ordem de step invertida (achado especifico do usuario, Rebecca e
familia "Blocker on-play recover+play"):** textos no formato "Add ...
from trash to hand. THEN, play ... from hand" tinham o `play_card`
appendado ANTES do `add_from_trash` no array de `steps` (porque
`parse_play_generic` roda mais cedo no dispatch que `parse_add_from_trash`).
`steps` e a ordem de EXECUCAO real -- rodar o play antes do add
significava tentar jogar uma carta que ainda nao tinha voltado pra mao.
Corrigido com deteccao do padrao encadeado + insercao do add ANTES do
primeiro `play_card` ja presente na lista (nao mexe na ordem quando o
padrao encadeado nao existe).

**Bug pego durante a validacao (nao no parser):** o executor de
`add_from_trash` em `decision_engine.py` nunca repassava `cost_gte` nem
`exclude_name` pra `eligible_cards` (so tinha os parametros antigos) --
corrigido junto, senao os campos novos do parser ficariam mortos.

**Validado:** `diff_parser.py` PERDEU=0, MUDOU=19 cartas (todas
conferidas manualmente contra o `card_text` cru antes de aceitar --
nenhuma regressao, todas ganhos reais). 2 testes dirigidos novos com
EXECUCAO real: `test_rebecca_add_from_trash_range_exclude_e_ordem`
(recupera o alvo certo dentro da faixa, ignora a copia da propria
Rebecca no trash, ignora alvo fora da faixa, confirma que o personagem
recuperado e jogado de verdade e entra restado). `smoke_fast.py` (79
checks) verde. `smoke_test.py` amplo verde apos corrigir 1 teste
desatualizado (`OP11-097` contava com trash SEM cor definida -- default
Red do helper local, texto real exige Black -- ajustado pra `color='Black'`
nas cartas de teste, o comportamento novo esta certo).

**Ainda pendente do lote de 10 do usuario:** OP05-040 Birdcage (condicao
de lider Doflamingo + clausula de "nao ficam ativos no Refresh Phase"),
OP16-116 (segunda clausula de roubo de carta da vida), OP16-108 Shiryu
(bloco `on_play` inteiro), OP10-098 Liberation (condicao de comparacao
relativa de board + segundo alvo de KO + bloco `[Trigger]` inteiro),
OP15-008 Krieg (condicao `just_played` + debuff dinamico por DON do
proprio alvo).

## 2026-07-15 (158) - Claude - Lote de 10 cartas revisadas manualmente pelo usuario: 4 causas raiz fechadas (don_on_field_gte sem "or more", chars_lte, reveal_from_hand, ko_selected encadeado)

**Contexto:** usuario colou uma revisao manual de 10 cartas (nao veio do
script de clustering, foi leitura carta a carta) com bugs anotados
diretamente por ele. Fechado o primeiro sub-lote de 3 causas raiz
compartilhadas + 1 mecanismo novo pontual desta leva:

**`don_on_field_gte` sem "or more" (6 cartas):** "if you have N DON!! cards
on your field" (sem o "or more") nao batia na regex existente, que exigia
literalmente "or more". Fallback adicionado -- semanticamente equivalente
porque N e sempre 10 (teto do deck de DON, nunca da pra ter mais).
OP05-040 (Birdcage/Doflamingo) e OP16-116 (Zehahahahaha) e familia.

**`chars_lte` (condicao nova, 4 cartas):** simetrico ao `chars_gte`
existente -- faltava o lado "ou menos" ("if you have N or less
Characters"). ST12-003 (Dracule Mihawk) e familia.

**`reveal_from_hand` (custo novo, 6 cartas):** "you may reveal N cards with
a type including "X" from your hand: [efeito]" nunca existia como tipo de
custo -- distinto de `trash_from_hand` porque REVELAR nao remove as cartas
da mao, so exige prova de posse. OP08-044 (Kingdew) e familia. **Bug
pego na validacao, nao no parser**: o check de `filter_type` usava
substring simples (`filter_type in sub_types.lower()`), que falha contra
o typo real do banco ("Whitebeard Piratess" vs "Whitebeard Pirates" sem
o segundo s) -- trocado para `_norm_type_text()` (mesma normalizacao ja
usada em `leader_type`/`leader_type_includes`), que tolera esse tipo de
divergencia de pluralizacao. Sem esse ajuste o smoke_test.py regredia
(`OP08-040 Atmos` deixava de conseguir pagar o proprio custo).

**`ko_selected` (acao nova, 1 carta -- OP09-098 Black Hole):** "negate the
effect of up to 1 of your opponent's Characters during this turn. Then,
if that Character has a cost of 4 or less, K.O. it." A segunda clausula
inteira estava ausente do parse -- so o `negate_effect` sobrevivia.
Implementado reaproveitando a memoria `_last_selected` (mesmo mecanismo
ja usado por `play_from_deck`/`buff_power` com `target: 'selected'`):
`negate_effect` agora grava o alvo negado em `_last_selected`, e o novo
step `ko_selected` mira essa mesma carta (checando `cost_lte`, imunidade
e substituicao antes de mandar pro trash -- mesma logica do `ko`
generico, so que sem busca de candidato, o alvo ja e conhecido).

**Ainda pendente do lote de 10 do usuario** (nao mexido nesta rodada,
ver TODO de continuidade): OP05-091 Rebecca (custo `add_from_trash` com
faixa 3-7 + ordem de step invertida), OP05-040 Birdcage (condicao de
lider Doflamingo + clausula inteira de "nao ficam ativos no Refresh
Phase" faltando), OP16-116 (segunda clausula de roubo de carta da vida),
OP16-108 Shiryu (bloco `on_play` inteiro faltando), OP10-098 Liberation
(condicao nova de comparacao relativa de board + segundo alvo de KO +
bloco `[Trigger]` inteiro faltando), OP15-008 Krieg (condicao
`just_played` + debuff dinamico por DON do proprio alvo -- mecanica nova).
OP06-022 Yamato: **confirmado que ja estava correto** desde o bloco 151
(`opp_life_lte:3` presente) -- o relato do usuario provavelmente veio de
saida desatualizada, nao precisa de acao.

**Validado:** `diff_parser.py` PERDEU=0 em cada etapa (isolou OP09-098
como unica mudanca na 1a rodada, depois confirmou clean apos
`gerar_dbs.py`+`snapshot_parser.py`). 1 teste dirigido novo com EXECUCAO
real (`test_black_hole_negate_e_ko_encadeado`): confirma que alvo custo
<=4 e negado E vai pro trash, e que alvo custo >4 so e negado (nao
morre). `smoke_fast.py` (77 checks) verde. `smoke_test.py` amplo verde
apos corrigir o teste desatualizado do Atmos (precisava de 2 cartas
"Whitebeard Pirates" na mao pra pagar o custo agora corretamente
detectado).

**Proxima sessao:** continuar o lote de 10 (6 itens pendentes acima),
depois retomar a varredura ampla por clustering nos suspeitos restantes
-- instrucao do usuario e permanente ("precisamos fazer uma varredura"),
nao e tarefa pontual.

## 2026-07-15 (157) - Claude - Mais 2 causas raiz da varredura ampla: total_life_lte (7 cartas) + don_on_field_lte (10 cartas)

**Continuacao direta do bloco 156, mesmo metodo de clustering.**

**`total_life_lte` (condicao nova, 7 cartas):** "you and your opponent
have a total of N or less Life cards" (SOMA da vida dos 2 lados) nunca
existia -- so `life_lte` (proprio) e `opp_life_lte` (oponente, bloco 151)
existiam separados. Familia Revolutionary Army (EB04-055, OP09-100,
OP09-108, OP09-112, OP09-114, OP10-100) e OP04-116 tinham efeitos
late-game (trigger-play, K.O. condicional) disparando SEMPRE, sem checar
o total combinado. Adicionado em `parse_conditions`/`_check_conditions`.

**`don_on_field_lte` (condicao nova, 10 cartas):** simetrico a
`don_on_field_gte` (que ja existia, proprio campo) -- faltava o lado "ou
menos". OP15-060/061/063/066/067/068 e OP13-003 (arquetipo "baixo DON =
recompensa", oposto de ramp) davam Rush/Blocker/imunidade/buff/debuff
SEMPRE, sem checar se o DON no campo estava realmente baixo. Achado
IMPORTANTE de arquitetura: existem 2 checadores de `conditions`
INDEPENDENTES no motor pra esse tipo de condicao --
`_check_conditions` (usado por `apply_conditional_keyword_passives`,
onde o bug realmente vivia) e `_effect_conditions_met` (usado em outro
lugar, checado por precaucao mas nao confirmado se algum caso real usa
`don_on_field_lte` por ali ainda) -- atualizados os DOIS, mesma licao do
Ipponmatsu (bloco 149): sempre conferir se ha checador duplicado antes
de considerar um fix completo.

**Validado:** 2 testes dirigidos novos com EXECUCAO real -- `total_life_lte`
testa on_play disparando/nao disparando conforme a soma; `don_on_field_lte`
testa `apply_conditional_keyword_passives` concedendo Rush de verdade
(`has_rush=True`) so quando o DON no campo esta baixo o suficiente.
`smoke_fast` (76 checks) + `smoke_test` amplo, ambos verdes. `diff_parser.py`
PERDEU=0 em cada etapa (17 cartas corrigidas nesta rodada).

**Estado da varredura:** ~458 -> ~441 suspeitos apos esta rodada (17
fechados, chars_gte_type_filter+debuff_power do bloco 156 ja tinham
fechado 18). Total desta sessao (blocos 143-157): 122+ cartas corrigidas
por causa raiz compartilhada, ao longo de ~15 causas raiz distintas.
Proxima sessao: continuar com o script de clustering
(`audit_parser_coverage.py` + agrupamento por contexto normalizado),
proximos clusters candidatos ja identificados no bloco 156 (varias
combinacoes de "up to N ... power" com clausulas condicionais anexas
que AINDA nao foram auditadas individualmente -- lembrar da armadilha de
falso-positivo documentada la antes de investir tempo).

## 2026-07-15 (156) - Claude - Retomada da varredura ampla (476 suspeitos restantes): 2 causas raiz corrigidas (18 cartas), metodo de clustering programatico introduzido

**Pedido do usuario:** "vamos corrigir e conferir aqueles 493 suspeitos"
-- retomar a lista completa do `audit_parser_coverage.py` (476 restantes
apos os fixes anteriores), nao so os 8 que ele ja tinha revisado a mao.

**Metodo novo (necessario pra escala de 476 itens):** em vez de ler cada
suspeito manualmente, escrevi um script auxiliar que agrupa os
"numeros perdidos" por CONTEXTO DE TEXTO normalizado (janela de ~65
chars ao redor de cada numero, digitos trocados por "N" pra clusterizar
fraseados iguais). Isso revela rapidamente quais padroes se repetem em
varias cartas (alto ROI) vs quais sao unicos (baixo ROI, avaliar
individualmente depois). 475 contextos distintos entre 476 cartas --
maioria e unica, mas os clusters do topo respondem por boa parte do
volume.

**Achado importante sobre falso-positivo:** o maior cluster ("Up to 1 of
your Leader or Character cards gains +N power during this battle", ~16
cartas) e MAJORITARIAMENTE FALSO POSITIVO -- o metodo numerico marca "1"
como perdido porque `buff_power`/`debuff_power` nao guardam um campo
`count` explicito pra alvo unico (implicito), entao o "1" nunca aparece
literalmente no JSON mesmo quando a carta esta parseada CORRETAMENTE.
Confirmado revisando 7 cartas desse cluster -- 6 ja estavam certas, 1
(EB03-020) tinha bug real (ver abaixo). Registrar isso: o metodo de
varredura tem uma classe de falso-positivo conhecida (contagem implicita
de 1 alvo), nao vale a pena caçar 1-por-1 nesse cluster especifico sem
confirmar primeiro se ha uma clausula condicional ou multiplos alvos de
verdade por trás do "1".

**Causa raiz #1 -- `chars_gte_type_filter` (condicao nova, 5 cartas):**
"if you have N or more {TIPO} type Characters" nunca existia como
condicao (so existia por CUSTO -- `chars_gte_cost_filter`). EB03-020 e
familia (EB04-016, EB04-017, EB04-033, OP07-059) tinham um efeito
condicional aplicando SEMPRE, sem checar o tipo. Corrigido em
`parse_conditions`/`_check_conditions`, mesma convencao de
`chars_gte_cost_filter` ja existente. Corrigiu tambem um teste antigo em
`smoke_test.py` (secao 15c) que sem querer testava esse bug (EB03-020
sem nenhuma condicao configurada no cenario).

**Causa raiz #2 -- `debuff_power` com `count>1` (13 cartas):** o
executor de `debuff_power` (comentario no proprio codigo ja avisava:
"parser nunca emite count pra estes alvos -- sempre 1 alvo") sempre
debuffava exatamente 1 personagem do oponente, mesmo quando o texto
pedia "up to 2" (ex: OP01-022, OP11-020). Parser ganhou extracao de
`count` quando >1 (preserva comportamento antigo pra N=1, nao adiciona
campo desnecessario); executor ganhou loop respeitando `count`
(reaproveita `choose_highest_board_value` + remove_by_identity, mesmo
padrao ja usado em `rest_opp_character`/outras acoes multi-alvo).

**Validado:** 2 testes dirigidos novos com EXECUCAO real (nao so parse)
-- debuff com count=2 afeta 2 alvos de verdade, priorizando os de maior
valor. `smoke_fast` (70 checks) + `smoke_test` amplo, ambos verdes (1
teste antigo corrigido pra nao testar o bug do EB03-020 por engano).
`diff_parser.py` PERDEU=0 em cada etapa, `gerar_dbs.py` + re-snapshot
feitos.

**Estado da varredura:** de ~509 suspeitos originais, restam ~458 apos
esta rodada (18 fechados). Proxima sessao deve continuar usando o
metodo de clustering (nao ler item por item) -- rodar o script de
agrupamento, revisar os proximos clusters de maior contagem, e ter
cuidado especial com o padrao de falso-positivo "alvo unico implicito"
antes de investir tempo em qualquer cluster de "+N power"/"-N power"
sem clausula condicional visivel.

## 2026-07-15 (155) - Claude - CORRECAO DE RUMO do usuario: "uso baixo em deck real" NAO e criterio valido pra pular mecanica -- OP12-020 e OP09-118 IMPLEMENTADOS de verdade (bloco 154 estava errado)

**O usuario corrigiu uma decisao minha do bloco 154.** Eu tinha deixado
OP12-020 (Zoro lider) e OP09-118 (Roger) documentados como "fora de
escopo" citando baixo uso em deck real (1 deck) como justificativa. O
usuario apontou 2 coisas: (1) ele lembrava de outra carta com restricao
de combate parecida (acabou nao sendo o padrao exato, mas o instinto de
"nao e so 1 carta" estava certo pro rastreio de combate -- 4 cartas
reais usam "battles your opponent's Character": OP04-047, OP12-020,
ST02-010, ST08-013); (2) mais importante, o CRITERIO em si estava
errado -- **"uso baixo hoje" nao e sinal confiavel, o banco so tem 50
decks catalogados por enquanto, o motor precisa funcionar pra qualquer
carta dos 2614 no banco**, nao so as que aparecem nos decks atuais.
Registrar isso como principio pra sessoes futuras: nao usar contagem de
uso em deck como criterio de prioridade de correcao de REGRA (heuristica
de qualidade de decisao pode ponderar por frequencia real; correcao de
REGRA nao deveria).

**OP12-020 (Zoro lider) -- implementado:**
- Novo rastreio de combate: `Card.battled_opp_character_this_turn`
  (bool, resetado no refresh_phase junto com just_played/rush_this_turn)
  -- setado em `_execute_attack` no momento em que o alvo FINAL (ja
  pos-blocker-redirect) e confirmado como Character do oponente. Serve
  tambem OP04-047/ST02-010/ST08-013 (mesma condicao textual), nao so
  Zoro.
- Nova condicao `battled_opp_character_this_turn` em `parse_conditions`/
  `_check_conditions`.
- Nova acao `lock_self_attack_opp_chars_cost_lte` -- "cannot attack your
  opponent's Characters with a cost of N or less during this turn",
  DISTINTA de `lock_opp_character_attack` (que trava o OPONENTE, mecanica
  oposta). Novo campo `Card.cannot_attack_opp_chars_cost_lte` (-1 =
  sem restricao), consumido na geracao de alvos de ataque
  (`_generate_and_score_actions`, filtra `opp.rested_chars(att)`).
- Bonus achado no caminho: "set this **card** as active" (ST02-010,
  ST02-013) nao era reconhecido como auto-referencia (so "this
  character"/"this leader" eram) -- `target` saia `own_character`
  generico em vez de `self`. Corrigido no mesmo lugar.

**OP09-118 (Roger) -- implementado, com um bug PRE-EXISTENTE achado no
caminho:**
- Nova acao `win_game_on_opp_blocker`. Achado real ao debugar: o card
  tem `[Rush]` (keyword nativa reconhecida), e isso desliga o mecanismo
  de fallback que capturaria a frase solta "when your opponent
  activates..." (2 guardas: `if not result` + `sem_tags_de_trigger`,
  ambas bloqueadas por QUALQUER tag em TODAS_TAGS incluindo `[Rush]`) --
  conectado direto no scanner de keywords em vez de depender do
  fallback.
- No caminho, achei que o MESMO scanner de keywords tinha um bug
  PRE-EXISTENTE (nao introduzido nesta sessao, ja estava no snapshot
  antigo): lia `[Blocker]` dentro de "your opponent activates
  [Blocker]" como Blocker NATIVO da propria carta, sem checar contexto
  (nenhuma janela de "gains" por perto pra cair no ramo de exclusao
  existente). Corrigido com guarda de contexto ("your opponent
  activates"/"opponent's" antes da tag => ignora). Bonus: OP06-048 e
  ST30-012 tambem tinham esse mesmo bug, corrigidos junto.
- Executor: apos o passo de Blocker em `_execute_attack`, se
  `p.life_count()==0 or opp.life_count()==0` E `p` tem algum
  Character/Leader com `win_game_on_opp_blocker`, retorna `True`
  (mesmo canal de sinal "venceu a partida" ja usado pelo win normal por
  vida).

**Validado com EXECUCAO real (nao so parse) nos 2 casos:** Zoro nao
ativa sem ter batido Character, ativa e aplica a restricao depois de
bater, a lista de alvos de ataque gerados exclui corretamente quem tem
custo <=7. Roger: `_execute_attack` retorna `True` (vitoria) no cenario
"oponente bloqueia com alguem em 0 vida". `smoke_fast` (68 checks
agora) + `smoke_test` amplo, ambos verdes. `diff_parser.py` PERDEU=0 em
cada etapa (4 rodadas: Zoro condicao+restricao, "this card" self-target,
Roger keyword bug, Roger win-condition).

**Lista do bloco 149 agora DE VERDADE encerrada, sem pendencias.**
Proximo passo: perguntar ao usuario se a Fase 1 do plano de 4 fases
pode ser liberada agora, ou se ele quer continuar descendo a lista de
suspeitos restante do `audit_parser_coverage.py` antes.

## 2026-07-15 (154) - Claude - Lista do bloco 149 ENCERRADA: OP09-118 (Roger) documentado como fora de escopo, ultimo item pendente

**Ultimo item da lista de 8 suspeitos que o usuario revisou manualmente
(bloco 149).** OP09-118 (Gol.D.Roger): "When your opponent activates
[Blocker], if either you or your opponent has 0 Life cards, you win the
game." -- condicao de vitoria ALTERNATIVA, unica no banco (so 4
reprints da MESMA carta, usada em 1 deck real salvo). Exigiria construir
um subsistema novo (rastrear "oponente ativou Blocker" como evento
disparavel + checagem de vitoria alternativa fora do fluxo normal de
"vida chega a 0"). Mesma decisao de custo-beneficio do OP12-020 (bloco
153): 1 carta muito rara nao justifica infraestrutura nova agora.
Documentado, nao implementado.

**RESUMO DA LISTA INTEIRA (blocos 149-154), pra quem retomar:**
- ✅ `hand_to_deck` (5 cartas, incl. Nami) -- bloco 149
- ✅ imunidade condicional (`leader_attribute`/`don_rested_gte`, 9 cartas,
  incl. Ipponmatsu) -- bloco 149
- ✅ `don_minus` sem sinal de menos na fonte (28 cartas, incl. Bullet
  String) -- bloco 150
- ✅ `attack_life` confirmado CORRETO (nao era bug) + `opp_life_lte`/
  `opp_life_gte` novos (45 cartas, incl. Kid) -- bloco 151
- ✅ `substitute_rest` (mecanica nova, PRB02-006 Zoro) -- bloco 152
- ✅ `parse_reveal_top_play` generalizado + alvo do Rush corrigido
  (OP12-058 Whitebeard) -- bloco 153
- ⏸ OP12-020 (Zoro lider, 2 clausulas) -- fora de escopo, exigiria 2
  mecanismos novos pra 1 carta
- ⏸ OP09-118 (Roger, win-condition alternativa) -- fora de escopo,
  exigiria 1 mecanismo novo pra 1 carta

**Total: 87+ cartas reais corrigidas nesta sessao (14/07-15/07) via
causa raiz compartilhada, mais 2 casos documentados como fora de escopo
com justificativa clara.** Todos os fixes seguiram o mesmo workflow
(`diff_parser.py` PERDEU=0 -> `gerar_dbs.py` -> re-snapshot -> teste
dirigido com EXECUCAO real, nao so parse -> `smoke_fast`+`smoke_test`
verdes -> commit -> push).

**Proximo passo natural:** a Fase 1 do plano de 4 fases
(`C:\Users\arthu\.claude\plans\cheeky-nibbling-lecun.md`) ainda esta EM
ABERTO -- a preocupacao do usuario sobre escopo do parser (bloco 144) foi
endereçada com uma varredura sistemica + revisao manual de 8 cartas +
correcao de tudo que fazia sentido corrigir agora. Perguntar ao usuario
se ele considera isso suficiente pra liberar a Fase 2 (fazer
archetype.mix/roles pesarem no score + generalizar win_con_code), ou se
quer continuar descendo a lista de ~490 suspeitos restantes (a grande
maioria sem uso em deck real, ver `audit_parser_coverage.py`) antes de
avancar.

## 2026-07-15 (153) - Claude - OP12-058 (Whitebeard) corrigido -- reveal-conditional-play + alvo do Rush (nao mais no Event, no personagem jogado); OP12-020 (Zoro lider) documentado como fora de escopo

**Continuacao da lista do bloco 149.**

**OP12-058 (Whitebeard) -- 2 bugs na mesma carta:**
1. `parse_reveal_top_play` (funcao que JA existia pro padrao "reveal 1
   card... if that card is [Tipo] with a cost of N or less, you may play
   that card") nao casava porque o fraseado do Whitebeard usa "with a
   TYPE INCLUDING "X" AND a cost of N or less" -- conjuncao "and" em vez
   de "with", e o tipo vem via "with a type including" em vez de "is
   [Tipo] type". Generalizado sem perder os casos antigos.
2. Depois de corrigido o play, achei um SEGUNDO bug ao testar execucao
   de verdade: "If you do, THAT CHARACTER gains [Rush]" aplicava o Rush
   na propria carta de Event (quem carrega o efeito), nao no personagem
   REVELADO E JOGADO do deck. Causa: o scanner generico de "gains
   [Rush]" (usado por dezenas de cartas) sempre aplicava a `card` (o
   dono do bloco), sem conceito de "carta selecionada por um step
   anterior". Fix: `play_from_deck` agora grava `self._last_selected`
   (mesma memoria ja usada por `buff_power`/`lock_self_character_refresh`
   target='selected'); o scanner de gain_rush detecta "that
   Character/card gains" ANTES do match E exige que ja exista um
   `play_from_deck` no MESMO bloco antes de marcar target='selected' --
   essa 2a guarda foi adicionada DEPOIS de eu quase quebrar OP16-079
   (passiva reativa "quando um Character e jogado do trash, esse
   Character ganha Rush" -- contexto de gatilho EXTERNO ao bloco, onde
   `_last_selected` nao seria confiavel; sem a guarda o Rush teria
   silenciosamente deixado de aplicar a qualquer coisa nessa carta).

**Validado com EXECUCAO real (nao so parse):** personagem revelado sai do
deck, entra em campo, E ganha Rush de verdade (`rush_this_turn=True`) --
nao mais no Event. `smoke_fast` (65 checks) + `smoke_test` amplo, ambos
verdes. `diff_parser.py` PERDEU=0 em cada etapa (2 rodadas: 1a so o
reveal-play, 2a so o alvo do Rush, isolando os 2 bugs).

**OP12-020 (Zoro lider) -- decidido NAO implementar, documentado:**
"If this Leader battles your opponent's Character during this turn, set
this Leader as active. Then, this Leader cannot attack your opponent's
Characters with a base cost of 7 or less during this turn." Exigiria 2
pecas de infraestrutura NOVAS que nao existem hoje: (1) rastreamento de
"o lider bateu um Character (nao Leader) este turno" -- nao existe
tracking de historico de combate no engine; (2) uma restricao de ataque
"nao pode atacar Characters do oponente com custo <= N" -- distinta de
tudo que ja existe (`lock_opp_character_attack` trava o OPONENTE,
`cannot_attack_self*` trava ataque total, nenhum filtra por CUSTO do
ALVO). So 1 carta real usa esse padrao exato -- custo de construir 2
mecanismos novos pra 1 carta nao compensa agora. Documentado aqui pra
nao esquecer, retomar se aparecer mais alguma carta com padrao
parecido.

**Resta da lista do bloco 149:** OP09-118 (Roger, win-condition
alternativa muito rara -- mesma decisao de escopo que OP12-020, avaliar
se vale a pena).

## 2026-07-15 (152) - Claude - Nova mecanica: substituicao de REST (PRB02-006 Zoro) -- 3a familia de substitute_*, reusando quase toda a infra de KO/removal

**Continuacao da lista do bloco 149/151.** PRB02-006 (Roronoa Zoro):
"[Opponent's Turn] If this Character would be rested by your opponent's
Character's effect, you may rest 1 of your other Characters instead."
Zero cobertura -- so 1 carta real no banco (3 reprints), mas e a MESMA
familia mecanica de `substitute_ko`/`substitute_removal` (ja usadas por
dezenas de cartas), so que pro efeito de "restar" em vez de K.O./remocao.

**Implementado (reuso quase total da infra existente):**
- Parser: nova `parse_substitute_rest` (gatilho "would be rested by your
  opponent"), dispatch identico ao de substitute_removal (claim do bloco
  a partir da clausula, preserva prefixo incondicional se houver).
- Novo custo `rest_own_other_character` (distinto do `rest_own_character`
  ja existente): exclui a PROPRIA carta que esta se substituindo dos
  candidatos -- Zoro nao pode "restar a si mesmo" como substituicao,
  precisa ser OUTRO character. `rest_own_character` (substituicao
  EXTERNA, onde quem paga e diferente de quem e protegido) nao precisava
  dessa exclusao, por isso ficou como um custo separado, nao alterei o
  existente.
- `try_substitute`/`try_any_substitute`: a condicao `aplica` (3
  ocorrencias) ganhou o 3o ramo (`action=='substitute_rest' and
  removal_kind=='rest'`) -- e CORRIGI um risco real ao mexer aqui: antes,
  `action=='substitute_removal'` casava incondicionalmente (sem checar
  removal_kind), o que teria feito cartas de substitute_removal
  aplicarem erroneamente tambem pra 'rest' se eu so tivesse ADICIONADO o
  novo ramo sem excluir 'rest' do ramo antigo. Adicionei
  `and removal_kind != 'rest'` no ramo de substitute_removal pra evitar
  esse cruzamento.
- `rest_opp_character` (execucao): antes de restar cada alvo, chama
  `EffectExecutor(opp, self.me).try_any_substitute(target, 'rest',
  source_is_opp=True)` -- mesmo padrao ja usado pelos loops de KO/removal
  (`EffectExecutor(owner, ...)` construido do ponto de vista do DONO do
  alvo, ja que quem paga o custo da substituicao e o dono, nao quem
  ataca).

**Validado com EXECUCAO real, nao so parse:** Zoro com um aliado no
campo, oponente tenta restar o Zoro -> Zoro fica ATIVO, aliado fica
RESTADO no lugar (log: "Roronoa Zoro evitou rest restando: Aliado").
`smoke_fast` (61 checks) + `smoke_test` amplo, ambos verdes. `diff_parser.py`
PERDEU=0 (so PRB02-006 mudou, como esperado pra carta unica), `gerar_dbs.py`
+ re-snapshot feitos.

**Nota de processo:** errei a ordem uma vez nesta tarefa -- rodei
`diff_parser.py` (confirma o que o GERADOR produziria) mas testei
execucao ANTES de rodar `gerar_dbs.py` de verdade, entao `get_card_effects`
ainda lia o JSON antigo e a substituicao "nao funcionava" (falso alarme,
so faltava regenerar). Lembrete pra proxima sessao: `diff_parser.py`
verde nao significa que `card_effects_db.json` ja foi atualizado --
sempre rodar `gerar_dbs.py` antes de testar execucao de verdade.

**Restam da lista do bloco 149:** OP12-058 (Whitebeard reveal-play
condicional), OP12-020 (Zoro lider, 2 clausulas), OP09-118 (Roger
win-condition unica, muito rara -- considerar se vale a pena construir
mecanica nova pra 1 carta so).

## 2026-07-15 (151) - Claude - OP10-112 (Kid) investigado: `attack_life` JA fazia trash-sem-trigger corretamente (nao era bug); `opp_life_lte`/`opp_life_gte` novos (45 cartas)

**Continuacao da lista do bloco 149.** Usuario reportou 3 problemas em
OP10-112 (Kid): (1) action deveria ser trash, nao attack (sem dano, sem
trigger, sem compra do oponente); (2) custo deveria ser opcional; (3)
falta condicao de vida do oponente no end_of_turn.

**(1) NAO era bug -- confirmado por execucao real, nao suposicao:**
apesar do nome `attack_life` sugerir "ataque", a execucao (`decision_engine.py`)
ja faz exatamente `opp.life.pop() -> opp.trash.append(c)`, SEM checar
`has_trigger`, SEM tocar `opp.hand`. Testei diretamente com uma vida
`has_trigger=True` no topo: foi pro trash, trigger nao disparou, mao do
oponente nao mudou. `attack_life` (nome ruim, comportamento certo) e
DIFERENTE de `deal_damage` (esse sim vai pra mao + pode disparar
trigger) -- as 2 acoes ja existiam separadas, corretas. Nao mexi em nada
aqui, so verifiquei.

**(2) Custo opcional -- decidido NAO mexer, e simplificacao deliberada
documentada:** `_worth_paying_optional_costs` (decision_engine.py:~5161)
tem docstring explicita: "Custos de RECURSO (rest_self/rest_don/don_minus)
não entram nessa conta -- já são filtrados por pagabilidade antes de
chegar aqui; só custos de SACRIFÍCIO (mão/campo/vida) exigem julgamento
de valor." Ou seja: pagar "you may rest this Character" e tratado como
sempre-vale-a-pena, por design (resting geralmente e barato). Mudar isso
afetaria MUITAS cartas com o mesmo padrao, nao so o Kid -- fora de escopo
pra correcao pontual, fica catalogado junto com a pendencia geral de
"up to N" da Fase 3 (ver bloco 148).

**(3) `opp_life_lte`/`opp_life_gte` -- gap real, corrigido:** condicao
"if your opponent has N or less/more Life cards" nunca tinha equivalente
no parser (so existiam `life_lte`/`life_gte` pro lado PROPRIO). Busca no
banco achou 45 cartas reais com esse padrao. Adicionado em
`parse_conditions` + `_check_conditions`, mesma convencao de
`opp_don_on_field_gte`/`opp_hand_gte` ja existentes. Confirmado por
amostragem que o parser ja distingue corretamente condicao por-STEP (ex:
OP05-114, so o 2o buff de uma cadeia de 2 e condicional) vs por-BLOCO
(ex: OP06-100, condicao no bloco `trigger` inteiro) -- nao precisou fix
adicional pra isso, ja funcionava.

**Validado:** teste dirigido novo com EXECUCAO real (nao so parse) -- Kid
compra de verdade (deck esvazia) quando vida do oponente <= 2, nao compra
nada quando > 2. `smoke_fast` (58 checks) + `smoke_test` amplo, ambos
verdes. `diff_parser.py` PERDEU=0 (19 cartas mudaram), `gerar_dbs.py` +
re-snapshot feitos.

**Restam da lista do bloco 149:** PRB02-006 (Zoro substituicao de rest),
OP12-058 (Whitebeard reveal-play condicional), OP12-020 (Zoro lider, 2
clausulas), OP09-118 (Roger win-condition unica) -- ainda nao
investigados/corrigidos.

## 2026-07-15 (150) - Claude - Bug de DADO sistemico achado (sinal "-" ausente em "DON!! -N:"): 28 cartas corrigidas, MAS 1a tentativa de fix introduziu duplicacao (autocorrigida antes de commitar)

**Contexto:** proxima pendencia da revisao do usuario no bloco 149 --
OP14-078 (Bullet String), usuario suspeitou "aqui tá faltando o sinal de
-, é DON!! -1". Confirmado: `cards_rows.csv` realmente tem "DON!! 1:" sem
o sinal de menos pra essa carta. Busca no banco inteiro achou **84
cartas** com a notacao curta de custo "DON!! N:" -- 51 SEM o sinal
(problema de dado na fonte) e 33 COM o sinal correto.

**Erro cometido e autocorrigido nesta sessao (registrar pra nao repetir):**
1a tentativa tratou "DON!! N:" como uma acao NOVA (`rest_don`), sem
perceber que o parser JA tinha um regex pra "DON!! -N:" (`don_minus`,
"devolve N DON do campo pro deck de DON" -- mecanica de ramp reverso,
DIFERENTE de rest_don que so tapa o DON temporariamente). Isso teria
CRIADO UM CUSTO DUPLICADO nas 33 cartas que ja tinham o sinal certo (a
carta pagaria rest_don E don_minus pro mesmo "DON!! -1:"). Pego pelo
`diff_parser.py` (EB01-038 mostrou os 2 custos juntos na mesma
comparacao) ANTES de rodar `gerar_dbs`/commitar -- corrigido removendo a
action nova e em vez disso estendendo o regex EXISTENTE de `don_minus`
(`gerar_effects_db.py`) pra aceitar fallback sem sinal de menos QUANDO o
numero e imediatamente seguido de ':' (a notacao oficial de custo sempre
tem o ':' colado, entao o fallback nao pega prosa que so MENCIONA DON!!
cards por acaso).

**Fix final (1 regex estendido, 28 cartas mudaram):** `don_minus` agora
tenta o regex com sinal primeiro; se nao casar, tenta
`don!!\s*(\d+)\s*:` (sem sinal, colon obrigatorio). OP14-078 e outras 27
cartas reais ganharam o custo `don_minus` que faltava -- antes a IA
ativava essas habilidades de graca, sem pagar o DON.

**Validado:** teste dirigido novo confirma NAO SO o parse, mas a EXECUCAO
real (OP14-078: 1 DON sai do campo, vai pro deck de DON, o buff so
acontece se o custo for pago). `smoke_fast` (54 checks) + `smoke_test`
amplo, ambos verdes. `diff_parser.py` PERDEU=0, `gerar_dbs.py` +
re-snapshot feitos.

**Nota pra quem continuar:** o processo de pegar o erro ANTES de commitar
(rodar `diff_parser.py` e OLHAR as mudancas, nao so checar PERDEU=0) foi o
que evitou consolidar um bug novo -- reforca que `diff_parser.py` serve
tambem pra AUDITORIA de conteudo, nao so regressao. Continuar essa
disciplina nos itens restantes da lista do usuario (ver bloco 149:
PRB02-006 Zoro substituicao, OP12-058 Whitebeard reveal-play, OP12-020
Zoro lider 2 clausulas, OP10-112 Kid trash-vs-attack, OP09-118 Roger
win-condition unica -- ainda nao corrigidos).

## 2026-07-15 (149) - Claude - Usuario revisou 8 suspeitos manualmente -- 14 cartas corrigidas via 2 causas raiz (loot pos-draw, imunidade condicional com checador dedicado)

**Contexto:** usuario leu a saida do `audit_parser_coverage.py` linha a
linha (nao consegue ler tudo, mas revisou um lote de 8 suspeitos) e trouxe
achados prontos, ja com a causa do erro identificada em varios casos.
Processados nesta sessao (2 corrigidos por causa raiz compartilhada, 6
documentados como pendencia por serem estruturalmente distintos/complexos
demais pra essa passada):

**1. `hand_to_deck` -- clausula "loot" apos draw, ausente por completo
(5 cartas: OP11-054 Nami, OP07-053, OP08-050, OP08-002, OP08-056):**
"Draw N cards and place M cards from your hand at the top or bottom of
your deck [in any order]" -- so o "draw N" sobrevivia, a clausula de
devolver M cartas pro deck sumia inteira. `parse_draw` ganhou ramo pra
essa clausula (nova action `hand_to_deck`, mesma convencao de
`opp_place_hand_bottom_deck` mas lado proprio). Usuario pediu
explicitamente pra buscar OUTRAS cartas com "top or bottom"/"any order" --
busca ampla achou 10 cartas com esse padrao textual, mas so essas 5
tinham a clausula REALMENTE ausente (as outras 5, com o padrao "look at N
cards... place at top or bottom", ja eram tratadas corretamente por
`look_top_deck`+`deck_reorder_rest` de sessao anterior).

**2. Imunidade condicional tinha um checador de condicoes SEPARADO e mais
pobre que o resto do motor (OP12-021 Ipponmatsu, "If your Leader has the
(Slash) attribute and you have 6 or more rested DON!! cards, this
Character cannot be rested..."):** achado estrutural real -- existem DOIS
verificadores de `conditions` no motor: `_check_conditions` (usado por
on_play/main/trigger, ja tinha varias condicoes) e `_immunity_conds_met`
(usado SO por `is_immune()`, MUITO mais pobre -- so tinha
`all_don_rested`/`life_lte`/`life_gte`/`only_field_type`). Adicionei
`leader_attribute` (parenteses como delimitador, achado novo -- os outros
usam aspas/colchetes/chaves) e `don_rested_gte` (distinto de `don_gte`,
que olha `don_available`) em AMBOS os checadores -- mas so
`_immunity_conds_met` afetava o Ipponmatsu de fato, ja que `is_immune()`
nao usa `_check_conditions`. Corrigiu um teste ANTIGO em `smoke_test.py`
que sem querer testava o BUG (setup sem lider Slash/DON rested, esperando
imunidade incondicional) -- atualizado pra montar o cenario completo.
Bonus: mais 4 cartas ganharam `leader_attribute`/`don_rested_gte` na
mesma regeneracao (OP07-023, OP12-034, OP12-036 entre outras).

**Pendencias documentadas, NAO corrigidas nesta sessao (revisar depois,
cada uma exige desenho proprio, nao e causa raiz compartilhada):**
- **PRB02-006 (Zoro)**: efeito de SUBSTITUICAO real ("If this Character
  would be rested by your opponent's Character's effect, you may rest 1
  of your other Characters instead") -- redireciona um rest pra OUTRO
  character proprio, mecanica de substituicao que ainda nao existe pra
  "rest" (so existe pra KO/removal via `try_substitute`).
- **OP14-078 (Bullet String)**: usuario suspeita que o TEXTO CRU esta
  errado na fonte ("DON!! 1" deveria ser "DON!! -1", falta o sinal de
  menos) -- precisa confirmar contra a carta real antes de decidir se e
  bug de dado (cards_rows.csv) ou like intencional.
- **OP12-058 (Whitebeard)**: "reveal 1 card from top of deck; if Character
  with type Whitebeard Pirates and cost<=9, you may play it" -- mecanica
  de reveal-condicional-play parcialmente coberta em outras cartas (Empty
  Throne), precisa investigar se da pra reusar ou se e um padrao novo.
- **OP12-020 (Zoro lider)**: activate_main perdeu 2 clausulas -- condicao
  de "so ativa se bateu um Character do oponente neste turno" E o segundo
  efeito ("nao pode atacar Characters custo<=7 este turno").
- **OP10-112 (Kid)**: 3 problemas na mesma carta -- custo devia ser
  OPCIONAL ("you may rest this Character"), a acao e TRASH da vida do
  oponente (nao ataque -- sem dano, sem trigger, sem compra pro
  oponente, distincao K.O.-vs-Trash do mesmo tipo ja documentada no
  CLAUDE.md), e falta a condicao "vida do oponente <= 2" no end_of_turn.
- **OP09-118 (Gol.D.Roger)**: condicao de vitoria ALTERNATIVA muito rara
  ("if either player has 0 Life cards when opponent activates Blocker,
  you win") -- mecanica unica no banco, exigiria um novo tipo de
  win-condition generico so pra esta carta.

**Validado:** `smoke_fast` (52 checks agora, 2 testes dirigidos novos
cobrindo execucao real, nao so parse) + `smoke_test` amplo, ambos verdes
apos corrigir o teste desatualizado. `diff_parser.py` PERDEU=0 em cada
etapa, `gerar_dbs.py` + re-snapshot feitos.

## 2026-07-15 (148) - Claude - "up to N" passa a ser um TETO de verdade (0..N), nao mais "sempre N" -- give_don ganha calculo de deficit real

**Pergunta do usuario que motivou isso:** depois do fix de contabilidade
do bloco 147, o usuario perguntou "e a questao do up to? pode ser up to x
dons, up to x character, etc" -- ou seja: "up to N" no texto da carta
significa o jogador escolhe LIVREMENTE entre 0 e N, nao "sempre N".

**Varredura feita primeiro (pedido explicito):** antes de mexer em
qualquer coisa, auditei os 19 lugares do motor que fazem
`for _ in range(count)` (mesma classe de risco do bug do DON, aplicada a
personagens/cartas). Todos os 19 ja sao seguros -- ou pre-checam
`len(candidatos) < count` antes do loop, ou tem `if not candidatos: break`
dentro dele. Conclusao: nao existe outro bug de "criar recurso do nada"
(mover carta de lista Python ja e auto-limitado; o bug do DON era
especifico de contador inteiro sem checagem). Reportado ao usuario antes
de prosseguir.

**Fix pedido explicitamente pelo usuario ("prefiro que ja ajuste o caso,
coisa que a fase 3 devia resolver"):** `give_don` (dar DON ao PROPRIO
personagem) agora calcula quanto DON e de fato NECESSARIO antes de usar o
teto do texto da carta -- mesma formula do "deficit BASE" de
`don_needed_for_attack` (`(opp.leader.power - attack_time_power(alvo,
opp) + 999) // 1000`, so a parcela obrigatoria, sem a margem de counter
que exige contexto de ataque declarado ainda inexistente neste ponto do
efeito). `count = min(count, necessario)` ANTES do calculo de debito do
banco (que ja tinha sido corrigido no bloco 147). Resultado: se o alvo ja
bate o poder do lider do oponente sem ajuda, da ZERO DON (nao desperdica);
se falta so 1, da 1 (nao o teto de 2, 3 etc. que a carta permitiria).

**Por que SO `give_don` e nao `give_don_opp`:** dar DON pro seu PROPRIO
personagem tem objetivo de vencer combate -- minimizar o gasto quando ja
basta e estritamente melhor (sobra DON pra defesa). Dar DON pro personagem
do OPONENTE (`give_don_opp`) tem objetivo OPOSTO (sobrecarregar/atrapalhar
o oponente, geralmente combinado com lock de refresh) -- ali o maximo
continua sendo a jogada certa, NAO mexi nesse lado.

**Validado:** `smoke_fast` (48 checks agora). O teste antigo do bloco 147
(`test_give_don_nao_inventa_don_quando_banco_insuficiente`) tinha usado o
MESMO lider dos 2 lados por acidente -- com o fix novo isso zerava o
`count` ANTES de chegar no cenario de banco insuficiente que o teste
queria isolar (mascarava o proprio teste). Corrigido pra usar um lider
oponente mais forte (isola as 2 checagens: quantidade inteligente E banco
insuficiente, separadamente). 2 testes dirigidos novos confirmam os 2
cenarios do calculo de deficit (zero gasto quando ja basta; gasto parcial
quando falta menos que o teto). `smoke_test` amplo verde.

**Documentado como pendencia MAIOR pra Fase 3 (nao resolvido agora, so
esse 1 caso concreto):** o mesmo raciocinio ("up to N" = escolha real 0..N,
nao sempre-maximo) provavelmente se aplica a outras acoes com efeito
negativo/custoso pro proprio jogador (`trash_own_life`, `trash_char_or_hand`
como custo, etc.) -- catalogado no bloco anterior (147) como pendencia de
qualidade de decisao, NAO consertado carta a carta agora (evitar
whack-a-mole disperso). A Fase 3 do plano (enumerador combinatorio de
turno) e o lugar certo pra resolver isso de forma sistemica -- este fix
foi uma excecao pontual pedida explicitamente pelo usuario, nao um sinal
pra sair corrigindo cada action nesse padrao uma a uma agora.

## 2026-07-15 (147) - Claude - Bug de CONTABILIDADE de DON achado pelo USUARIO (give_don/give_don_opp inventava DON quando o banco nao tinha o suficiente)

**Como foi achado:** o usuario estava investigando os suspeitos da
varredura (bloco 145/146) e reparou em ST01-011 (Brook, "Give up to 2
rested DON!! cards to your Leader or 1 of your Characters" -> parsed
`{'action': 'give_don', 'count': 2, 'rested': True}`) e perguntou se
"up to 2" virar um `count` fixo de 2 estava certo. Investigando a duvida,
achei algo mais serio que semantica de "up to": em `give_don` E
`give_don_opp` (`decision_engine.py`), o codigo fazia
`best.don_attached += count` (o valor CHEIO pedido pela carta) ANTES de
calcular quanto o banco de DON realmente tinha disponivel pra debitar. Se
o banco tivesse MENOS que `count` (ex: carta pede ate 2, banco so tem 1
rested), o personagem recebia os 2 DON anexados mesmo assim -- o debito
real do banco era so parcial (`min(count, don_rested)`), entao o DON
extra vinha do NADA. Ironia: o comentario do proprio codigo ja dizia "a
IA nao inventa DON" -- a intencao estava certa, a ordem das operacoes
que estava errada.

**Reproduzido e confirmado antes do fix** (banco com 1 don_rested, carta
pede ate 2): `don_rested` ia pra 0 (debito correto), mas `don_attached`
subia pra 2 (deveria ser 1) -- 1 DON fantasma criado por execucao.

**Fix:** os dois blocos (`give_don`, `give_don_opp`) agora calculam
`transferido` (o que foi de fato debitado do banco, considerando
prioridade rested/available conforme o texto da carta) ANTES de anexar,
e anexam exatamente esse valor -- nunca mais o `count` bruto. Mensagem de
log tambem corrigida pra refletir o valor real transferido.

**Sobre a pergunta original do usuario ("up to" vira count fixo, ta
certo?):** sim, isso em si e uma simplificacao aceitavel -- dar o MAXIMO
de DON permitido pro melhor atacante e quase sempre a jogada correta
estrategicamente (mais DON no atacante certo raramente e errado), entao
tratar "up to N" como "sempre tenta dar N" nao e bug de heuristica. O bug
real era so a dessincronia entre o que era ANEXADO e o que era DEBITADO
quando o banco nao cobria o pedido.

**Auditoria de escopo (fixes globais, nao pontuais):** busquei todos os
outros lugares que fazem `card.don_attached +=` no motor
(`attach_don`/`_attach_don_for_attack`) -- ambos JA calculavam o valor
minimo/limitado ANTES de anexar (`anexar = min(falta, p.don_available)`),
sem o mesmo bug. So `give_don`/`give_don_opp` tinham o problema.

**Validado:** `smoke_fast` (46 checks agora, 1 teste dirigido novo
reproduzindo o cenario banco-insuficiente com ST01-011) + `smoke_test`
amplo, ambos verdes. Sem mudanca de parser aqui (e bug de EXECUCAO, nao
de `gerar_effects_db.py`) -- nao precisou de `diff_parser`/`gerar_dbs`.

## 2026-07-15 (146) - Claude - 9 cartas reais corrigidas via varredura sistemica (3 causas raiz compartilhadas, nao carta a carta)

**Pedido do usuario:** "vamos corrigir!" (autorizacao explicita pra sair do
modo so-diagnostico e comecar a consertar a lista do bloco 145) + pediu
pro script mostrar texto cru + efeito parseado juntos na propria listagem
(nao so no `--code`) -- feito, `print_report` agora imprime as duas caixas
completas por suspeito, nao so um resumo de 220 caracteres.

**Metodo seguido:** revisar o top-N da lista priorizada
(`audit_parser_coverage.py`), agrupar por CAUSA RAIZ compartilhada (nao
consertar carta por carta -- ver [[feedback_fixes_globais_nao_pontuais]]),
e para cada grupo: 1 fix no `parse_*` certo -> `diff_parser.py` (PERDEU=0)
-> proxima carta do MESMO grupo -> so entao `gerar_dbs.py` + re-snapshot +
teste dirigido + `smoke_fast`/`smoke_test` pro grupo inteiro.

**3 causas raiz corrigidas, 9 cartas reais fechadas:**

1. **`lock_opp_character_refresh` perdendo TODOS os filtros** (4 cartas:
   OP04-031, OP07-026, OP15-025, OP15-038) -- o regex principal de
   "will not become active in next Refresh Phase" (`gerar_effects_db.py`,
   funcao de trava de refresh) so aceitava "up to N of your opponent's
   rested X [with a cost of Y or less]" -- 3 variantes reais de fraseado
   quebravam isso e caiam no fallback `lock_opp_don` SEM NENHUM filtro
   (nem count): "up to A TOTAL OF N" (OP04-031), filtro de "N+ DON anexado"
   em vez de custo com "with"/"that has" variando (OP15-025/038), e posse
   ("of your opponent's") implicita so no FIM da frase em vez do inicio
   (OP15-025). Regex generalizado sem perder os casos antigos. Consumidor
   (`lock_opp_character_refresh` em `decision_engine.py`) ganhou filtro
   `don_attached_gte` (nao tinha, so cost_lte/cost_eq).
2. **Alvo MISTO "Characters or DON!! cards" sem parser nenhum** (2 cartas:
   OP06-035 Hody Jones **7x em deck real**, OP12-037) -- a clausula inteira
   "Rest up to a total of 2 of your opponent's Characters or DON!! cards"
   ficava 100% ausente do parseado (so a clausula SEGUINTE da mesma carta
   sobrevivia). `parse_rest_opp` ganhou ramo pra esse alvo misto
   (aproximado como `rest_opp_character` -- engine ainda nao modela
   "escolha entre 2 tipos de alvo" nessa acao, documentado no comentario).
3. **`give_don_opp` com "of your opponent's" ENTRE o numero e "DON!!
   cards"** (3 cartas: OP15-008 Krieg **4x em deck real**, +2 de BONUS
   achadas pelo mesmo fix sem estarem no top-15: OP15-015, OP15-026) --
   "Give up to 3 OF YOUR OPPONENT'S RESTED DON!! cards to..." nao casava
   porque o regex exigia "(rested )?don!!" logo apos o numero. Consumidor
   (`give_don_opp`) ja suportava `count`/`rested` direito, so precisou do
   fix de parser.

**Validado:** `smoke_fast` (agora 44 checks, 4 novos dirigidos cobrindo os
3 grupos, incluindo EXECUCAO real -- Kuro congela so o alvo com DON
suficiente, nao so o parse) + `smoke_test` amplo, ambos verdes.
`diff_parser.py` PERDEU=0 em cada etapa, `gerar_dbs.py` + re-snapshot
feitos. Varredura geral caiu de 509 para 502 suspeitos (a contagem nao cai
1:1 com cartas corrigidas -- o metodo numerico tem falso-negativo quando
um numero do texto coincide por acaso com outro numero ja presente em
outro lugar do JSON, ex: OP15-015/026 nao apareciam entre os 509 originais
mas tinham o MESMO bug real, so nao foram sinalizados por essa coincidencia
-- limitacao conhecida do metodo, documentada no proprio script).

**NAO FEITO ainda (lista ainda tem ~493 suspeitos, a maioria baixo/zero
uso em deck real):** os proximos da lista priorizada por uso
(`python audit_parser_coverage.py --show 20`) sao majoritariamente bugs
DISTINTOS um do outro (condicao de vida do oponente/propria faltando,
clausula de trigger inteira ausente, etc.) -- nao tem mais causa-raiz
compartilhada obvia nos top itens restantes, cada um provavelmente exige
fix pontual (o que esta OK -- "fixes globais nao pontuais" significa achar
a causa raiz quando ELA EXISTE compartilhada, nao proibir fix de carta
unica quando o bug realmente e so daquela carta).

**Proxima sessao:** continuar a lista com `python audit_parser_coverage.py
--show 20` (a partir de `OP10-098 Liberation`, `OP16-108 Shiryu`,
`OP06-104 Kikunojo`, etc.), revisando cada suspeito antes de assumir bug
(o metodo aponta suspeitos, nao bugs confirmados). Fase 1 do plano de 4
fases segue EM ABERTO -- perguntar ao usuario se ele quer fechar mais da
lista antes de liberar a Fase 2, ou se aceita seguir com o que ja foi
corrigido.

## 2026-07-14 (145) - Claude - Varredura SISTEMATICA do parser (audit_parser_coverage.py) -- 57 cartas usadas em decks reais com numero(s) do texto ausentes do parseado

**Resposta direta a preocupacao do bloco 144:** usuario pediu a varredura
ampla, mas avisou que nao lembra de cabeca todos os padroes de condicao
possiveis ("intervalo N a M" e "N+ DON anexado" foram so os 2 que a gente
JA tinha achado por acaso). Em vez de tentar listar padroes conhecidos
(sempre incompleto), o script usa um criterio GENERICO: compara o CONJUNTO
de numeros do texto cru de cada carta com o CONJUNTO de numeros que
aparecem em QUALQUER LUGAR do JSON parseado daquela carta. Numero no texto
que nao aparece em lugar nenhum do parseado = candidato a "perdido pelo
parser" -- independe de eu ter pensado nesse tipo de condicao antes.

**Validacao do metodo:** rodado contra OP15-001 (Krieg, ja corrigido no
bloco 143) -> zero suspeitos (confirma que o fix realmente fechou o gap).
Rodado contra OP15-025 (Kuro, "3+ DON anexado", identificado no bloco 143
mas NAO corrigido por estar fora do escopo do Krieg) -> aponta os numeros
`1` e `3` perdidos, batendo exatamente com o bug real ja conhecido. Ou
seja: o metodo pega o mesmo tipo de bug que a inspecao manual pegou, sem
eu ter codificado o padrao especifico.

**Resultado da varredura completa (2614 cartas, dedupe por texto -- reprints
com texto identico contam 1x):**
- 509 cartas (texto unico) tem pelo menos 1 numero do texto ausente do
  parseado.
- Dessas, **57 sao usadas em pelo menos 1 deck real** salvo em
  `E:\Games\OnePieceSimulador\Builds_Windows\Decks` -- lista PRIORIZADA por
  quantidade de decks que usam (nao adianta revisar as ~450 cartas que
  ninguem joga primeiro).
- Achado NOVO e maior que os 2 do bloco 143 durante a validacao: **OP06-035
  (Hody Jones, usado em 7 decks)** tem a clausula inteira "Rest up to a
  total of 2 of your opponent's Characters or DON!! cards" **COMPLETAMENTE
  AUSENTE** do parseado -- so a parte "add 1 card from Life to hand" foi
  parseada, o rest de ate 2 alvos do oponente sumiu por inteiro. Nao
  corrigido ainda (achado durante a validacao do script, nao o alvo da
  sessao).
- Top 15 por uso em deck real (ver saida completa rodando o script):
  OP06-035 (7x), OP12-037 (6x), OP15-008/OP15-025/OP04-031/OP06-115 (4x
  cada), OP10-098/OP16-108/OP06-104/OP07-026/ST12-003 (3x cada),
  OP06-022/OP15-038/OP05-040/OP05-091 (2x cada).

**IMPORTANTE -- isso NAO prova 57 bugs confirmados.** E uma lista de
SUSPEITOS por criterio numerico, nao uma auditoria carta-a-carta manual.
Vai ter falso positivo (numero redundante, coberto por logica fora do
step tipo `costs`, ou numero de flavor text que escapou do filtro de
parenteses). Cada item da lista precisa de 5-10s de revisao humana (rodar
`python audit_parser_coverage.py --code XXXX` mostra texto+parsed+numeros
perdidos lado a lado) antes de virar fix de verdade -- mesmo workflow do
bloco 143 (fix pontual na funcao `parse_*` certa + `eligible_cards`/consumo
se for filtro de alvo + diff_parser PERDEU=0 + gerar_dbs + re-snapshot +
teste dirigido no smoke_fast).

**Uso do script:**
```
python audit_parser_coverage.py                 # varre tudo, resumo
python audit_parser_coverage.py --show 60        # lista mais itens
python audit_parser_coverage.py --code OP06-035  # 1 carta, detalhado
```

**NAO FEITO NESTA SESSAO (creditos acabando, usuario vai pro Codex):**
nenhum dos 57 suspeitos foi corrigido ainda (so os 2 do bloco 143,
Krieg/Kid, ja fechados). Esta e a tarefa que fica pra proxima sessao --
revisar a lista prioritizada por uso em deck, confirmar cada suspeito de
verdade (nao assumir bug so pelo flag), corrigir na funcao `parse_*`
certa, seguindo o mesmo workflow ja rodado 2x nesta sessao.

**Fase 1 do plano de 4 fases:** com essa varredura entregue, a preocupacao
do usuario ("nao adianta consertar so 1 lider") tem agora uma resposta
CONCRETA (lista de 57 suspeitos priorizados, nao mais uma suspeita vaga).
Ainda assim, tratar Fase 1 como EM ABERTO ate o usuario revisar essa lista
e decidir se quer corrigir tudo antes da Fase 2, corrigir so os
top-N, ou seguir pra Fase 2 aceitando que mais bugs vao aparecer aos
poucos conforme decks forem testados -- NAO decidir isso sozinho na
proxima sessao, perguntar.

## 2026-07-14 (144) - Claude - HANDOFF de troca de sessao (creditos acabando): preocupacao do usuario sobre escopo real do problema de parser

**Mensagem do usuario, literal, IMPORTANTE pra quem pegar a sessao (Codex ou
outra Claude):** "é isso que eu digo sobre entender o efeito do líder e da
carta, nosso bot tá cego e jogando errado porque não compreende direito
cada texto. e não adianta corrigimos só para o krieg agora sendo que ele
irá errar para outros líderes e cartas. Por exemplo pelo jogo do bot tenho
certeza de que ele não sabia que o kid líder desvirava um supernova de
custo 3 a 8 e dava blocker para ele, isso se flipasse a vida para cima."

**Leitura correta disso:** os 2 bugs do bloco 143 (Krieg `don_attached_gte`,
Kid `cost_gte` no intervalo 3-8) NAO sao um caso isolado resolvido -- sao
prova de que o parser (`gerar_effects_db.py`, ~2600 cartas, dezenas de
funcoes `parse_*`) tem gaps de gramatica ESPALHADOS, e cada carta/lider
NUNCA testado especificamente pode ter o mesmo tipo de erro silencioso
(campo cai no fallback errado sem nenhum erro/warning). O bloco 143 ja
achou, so DE PASSAGEM buscando o padrao exato do Krieg/Kid, mais 4 cartas
com o MESMO tipo de padrao mas em parsers diferentes (OP15-025/038 --
"N+ DON anexado" via `give_don_opp`/`lock_opp_don`; EB03-060/OP05-088/
OP05-091 -- "cost of N to M" via parsers de busca em deck/trash) que
NAO foram corrigidas (fora do escopo dos 2 lideres em teste hoje).

**Pendencia real e prioritaria pra quem continuar:** nao existe hoje uma
auditoria SISTEMATICA que rode sobre as ~2600 cartas do banco e sinalize
"este texto tem um padrao (intervalo 'N to M', filtro de DON anexado,
condicao composta, etc.) que pode nao estar totalmente capturado pelo
parser". O que existe (`audit_card_effects.py`) precisa ser conferido se
ja cobre isso ou se e outra coisa -- NAO CONFERIDO ainda nesta sessao,
verificar antes de propor solucao nova. Ideia a considerar (nao decidida,
nao comecar sem validar com o usuario): um "linter" de gramatica que rode
sobre o card_effects_db.json inteiro e aponte padroes de texto conhecidos
por serem tramposos (intervalos, contadores de DON anexado, condicoes
"if you have N cards given", multiplos filtros na mesma clausula) SEM
representacao correspondente no step parseado -- silencioso ate agora
porque ninguem tinha comparado texto cru vs parseado em escala, so carta a
carta via `audit_leader_and_goal.py`.

**Estado do plano de 4 fases (ver `C:\Users\arthu\.claude\plans\cheeky-nibbling-lecun.md`,
aprovado pelo usuario nesta sessao):**
- Fase 1 (script `audit_leader_and_goal.py` + confirmar entendimento do
  lider/objetivo): ENTREGUE, 2 bugs reais achados e corrigidos (bloco 143).
  **AINDA NAO CONFIRMADA pelo usuario como concluida** -- ele levantou a
  preocupacao acima em vez de liberar a Fase 2. Tratar como Fase 1 EM
  ABERTO ate ele confirmar explicitamente, nao assumir que esta pronta.
- Fase 2 (archetype.mix/roles pesarem no score + generalizar win_con_code):
  NAO COMECADA. Bloqueada ate Fase 1 ser de fato confirmada -- e agora
  bloqueada tambem pela pergunta em aberto "quantos outros lideres/cartas
  tem esse tipo de bug?".
- Fase 3 (enumerador combinatorio de turno): NAO COMECADA, depende da 2.
- Fase 4 (peso fino lethal/sobrevivencia): NAO COMECADA, depende da 3.

**Constraint ainda ativa:** "nao whack-a-mole ate eu liberar" (ver
[[feedback_no_whack_a_mole_ate_liberar]]) -- os 2 fixes de parser do
bloco 143 NAO violam isso porque nasceram do proprio script de diagnostico
estrutural da Fase 1, nao de cacar bug em log ao vivo. Mas a proxima acao
NAO deveria ser "ir carta por carta" tambem -- e exatamente o padrao que
o usuario quer evitar. Antes de continuar, avaliar com o usuario se a
resposta certa e (a) uma auditoria automatica ampla do parser (ver ideia
acima) antes de seguir pra Fase 2, ou (b) ele aceitar que Fase 2/3
vao naturalmente expor mais desses bugs conforme aparecem em decks
testados, sem precisar caçar todos de uma vez agora.

**Proxima sessao (Codex ou outra Claude) deve:**
1. Ler este bloco + bloco 143 antes de tocar em qualquer coisa.
2. NAO comecar a Fase 2 sem o usuario confirmar que a preocupacao acima
   foi endereçada (auditoria ampla feita, ou ele decidir seguir mesmo
   assim).
3. Rodar `smoke_fast.py` + `smoke_test.py` pra confirmar que o estado
   commitado (`61a4830`) segue verde antes de qualquer mudanca nova.

## 2026-07-14 (143) - Claude - Fase 1 do plano "bot entende antes de jogar melhor": audit_leader_and_goal.py + 2 bugs REAIS de parser achados e corrigidos

**Contexto:** depois do bloco 142, usuario jogou mais 1 partida ao vivo
(bot pilotando Krieg vs usuario no Kid) e perdeu feio -- log do engine
mostrava `_simulate_sequence_values` ja avaliando -50000.0 por volta do T5
(posicao ja perdida ha turnos). Usuario decretou: chega de whack-a-mole,
seguir uma ORDEM FIXA: (1) confirmar que o bot entende o lider+objetivo,
(2) confirmar que conhece o proprio deck, (3) so entao mapear combinacoes
de jogada por turno, (4) so entao pesar lethal/sobrevivencia. Plano de 4
fases aprovado (`C:\Users\arthu\.claude\plans\cheeky-nibbling-lecun.md`),
ver tambem [[project_full_deck_knowledge]].

**Fase 1 entregue:** `scriptis_da_ia/audit_leader_and_goal.py` -- script
novo (familia dos `audit_*.py` existentes), roda `python
audit_leader_and_goal.py <Deck>` e mostra: texto CRU da carta do lider
(cards_rows.csv) lado a lado com o que `get_card_effects` parseou, o que
`full_deck_profile` derivou (archetype.mix/roles/derived_axes) marcando
pra cada item se INFLUENCIA algum score hoje ou nao, e confirma
`can_lethal_this_turn()`/`analysis_priority()` em 2 cenarios sinteticos
(lethal obvio vs sem lethal). Reescrito 1x nesta sessao depois do usuario
apontar que a 1a versao (a) escondia campos do bloco parseado
(`don_requirement` sumia da tela por eu so imprimir `conditions`/`steps`)
e (b) a linguagem "CONSOME NO SCORE: nao" soava como estado aceitavel em
vez do BUG que realmente e -- reescrito pra "usado na decisao hoje? NAO --
isso e um GAP a corrigir na Fase 2, nao uma escolha de design".

**2 bugs REAIS de parser achados rodando o proprio script (nao suposicao --
o usuario literalmente leu a saida e falou "tem coisa errada"):**

1. **Krieg (OP15-001), `activate_main`**: texto real e "Rest up to 1 of
   your opponent's Characters **that has 2 or more DON!! cards given**".
   `parse_rest_opp` (gerar_effects_db.py) nunca teve gramatica pra
   "personagem com N+ DON anexado" como filtro de ALVO -- caia sempre no
   fallback `cost_lte: 99` (sem filtro nenhum). Ou seja: o Krieg real do
   usuario, jogando ao vivo, restava QUALQUER personagem do oponente, nao
   so os com 2+ DON -- um erro de REGRA, nao so de heuristica. Busca no
   banco inteiro achou 17 cartas com esse padrao de texto, mas so
   `parse_rest_opp` tinha esse bug especifico (as outras usam acoes/parsers
   diferentes -- ex. OP15-025/038 nao passam por essa funcao -- fica
   documentado como pendencia, nao consertado agora pra nao explodir
   escopo).
2. **Kid (OP10-099), `end_of_turn`**: texto real e "Supernovas type
   Characters with a **cost of 3 to 8**" (intervalo). `parse_set_active`
   so tinha gramatica pra "cost of N" e "cost of N or less" -- o regex
   `cost of (\d+)` casava so o primeiro numero e o resto ("to 8") ficava
   ignorado, virando `cost_eq: 3` (SO custo exatamente 3, perdendo
   4-8 inteiro). Achado por INSPECAO VISUAL do usuario comparando a saida
   do script com o texto real da carta -- exatamente o motivo de eu ter
   reescrito o script pra mostrar as duas caixas lado a lado. Busca no
   banco achou mais 3 cartas com "cost of N to M" (EB03-060, OP05-088,
   OP05-091), mas passam por parsers DIFERENTES (busca em deck/trash, nao
   `set_active`) -- fica documentado como pendencia, nao consertado agora.

**Fix de cada um (mesmo padrao, workflow padrao do parser):**
- `don_attached_gte` (novo param em `eligible_cards`, `rules_facade.py`)
  + `parse_rest_opp` emite o filtro quando o texto tem "that has N or more
  DON!! cards given" + os 2 pontos de consumo real (`_step_is_viable` e
  execucao de `rest_opp_character`, `decision_engine.py`) passam o filtro
  adiante.
- `cost_gte` (novo param em `eligible_cards`) + `parse_set_active` detecta
  "cost of N to M" ANTES do fallback de `cost_eq` + o consumo real de
  `set_active` passa `cost_gte` adiante.
- Ambos: `snapshot_parser.json` antes -> fix -> `diff_parser.py` (PERDEU=0,
  exatamente 1 carta mudou por vez, sem regressao) -> `python gerar_dbs.py`
  -> re-`snapshot_parser.py` -> `diff_parser.py` limpo de novo.
- 4 testes dirigidos novos em `smoke_fast.py`
  (`test_krieg_rest_opp_requires_2_don_attached`,
  `test_kid_leader_set_active_respects_cost_range`) confirmando NAO SO o
  parse, mas a EXECUCAO real (EffectExecutor de verdade resta/ativa o alvo
  certo e nao o errado).

**Validado:** `smoke_fast` (36 checks agora) + `smoke_test` amplo verdes.
Server AINDA NAO reiniciado com esses fixes -- proxima acao antes de
qualquer teste ao vivo novo.

**Pendencias documentadas (NAO consertadas agora, fora do escopo dos 2
lideres em teste):** OP15-025/038 (mesmo padrao "N+ DON anexado" como
filtro, mas via `give_don_opp`/`lock_opp_don`, parsers diferentes de
`parse_rest_opp`); EB03-060/OP05-088/OP05-091 (mesmo padrao "cost of N to
M", mas via parsers de busca em deck/trash, nao `parse_set_active`).

**Proximo passo:** usuario ainda revisando a saida do `audit_leader_and_goal.py`
pros 2 decks (Krieg/Kid) antes de autorizar a Fase 2 (fazer
`archetype.mix`/`roles` pesarem no score + generalizar `win_con_code`) --
NAO comecar a Fase 2 sem essa confirmacao explicita, e exatamente o ponto
que motivou o plano de 4 fases.

## 2026-07-14 (142) - Claude - Bot passa a "conhecer o proprio deck inteiro" (game_plan + arquetipo/eixos/papeis) igual jogador humano, offline E ao vivo

**Pedido explicito do usuario:** apos o fix estrutural do bloco 141
(`full_deck_census`), usuario pediu mais 2 coisas na mesma mensagem:
1. **"Proibir whack-a-mole ate eu liberar"** -- constraint valendo pra
   qualquer sessao futura (Claude ou Codex): NAO caçar bug log a log até o
   usuario autorizar de novo explicitamente.
2. **Bot deve ler arquetipo/papeis/eixos ANTES da partida e lembrar em toda
   decisao** -- "ele tem que saber que carta tem no deck, combos,
   arquetipo, eixos, curva, etc.", igual um jogador humano conhece o
   proprio deck desde o T1, nao so o que ja comprou/revelou.

**Fix (mesmo padrao do `full_deck_census`, aplicado a mais 2 campos):**
- `decision_engine.py`: extraida `compute_game_plan_from_cards(cards: list)
  -> dict` (logica pura de `compute_game_plan`, recebe `list[Card]` direto
  em vez de escanear zonas incrementalmente reveladas). `compute_game_plan(p)`
  e `deck_profile_for(p)` agora preferem `p.full_deck_plan`/
  `p.full_deck_profile` quando presentes, com fallback pro scan de zonas
  antigo se nao setado (degrada gracefully, zero regressao pros
  caminhos que ainda nao populam esses campos).
- `OPTCGMatch.__init__` (offline): popula `full_deck_plan` (via
  `compute_game_plan_from_cards`) e `full_deck_profile` (via
  `build_profile_from_codes`, guarded) pros dois lados, logo apos o
  `full_deck_census` do bloco 141.
- `server.py._dto_to_gs` (ao vivo): mesmo lookup lider->`.deck` ja usado
  pro census (`bridge.deck_cards_for_leader`) agora tambem popula
  `gs.full_deck_plan` e `gs.full_deck_profile`, no mesmo bloco `if
  gs.leader is not None`.

**Opiniao tecnica sobre o design (usuario perguntou "acha que fica
bom?"):** sim, e o design certo. Motivo: replica exatamente o padrao ja
validado do `full_deck_census` (bloco 141) -- computa 1x do deck REAL e
COMPLETO (nao do que foi revelado ate agora), cacheia como atributo simples
no `GameState` (sem `__slots__`, custo zero), e os consumidores existentes
(`compute_game_plan`, `deck_profile_for`) so precisam de 1 checagem "se
setado, usa; senao, cai no scan antigo" -- risco baixo, sem quebrar nenhum
caminho que ainda nao popula esses campos (ex: se algum teste cria
GameState manual sem full_deck_plan, comportamento antigo preservado
identico). Fecha exatamente o gap que fazia `compute_game_plan`/
`deck_profile_for` verem so "o que ja foi comprado/jogado" em vez do que um
humano sabe desde o mulligan.

**Medido (offline, `baseline_metrics.py --deck-a Imu --deck-b Kid --n 15
--seed 1`, pedido explicito do usuario "meça agora o offline rápido"):**
```
winrate:       Imu 0.667  vs  Kid 0.333
dano_por_jogo: Imu 4.13   vs  Kid 2.73
don_por_atk:   Imu 0.84   vs  Kid 1.34
```
Kid ainda perde a maioria dos jogos simulados, mas `don_por_atk` mais alto
sugere que o Kid do bot esta gastando mais DON por ataque realizado agora
(menos ataques "de graca"/desperdicados) -- compativel com `posture()`
finalmente enxergando o census real do Kid ('control', ver bloco 141) e
ajustando o comportamento de acordo. Nao e uma prova definitiva de melhora
de qualidade de jogo (winrate offline sozinho nao captura isso), so um
sinal de que o dado estrutural agora influencia o jogo de fato. Confirmacao
real ainda depende de partida ao vivo (proximo passo natural, nao feito
nesta sessao).

**Validado:** `smoke_fast` (32 checks) + `smoke_test` (amplo) verdes.
Server AINDA NAO reiniciado com este fix -- proxima acao antes de testar ao
vivo.

**Constraint ativa pra proxima sessao:** NAO voltar a caçar bug log a log
sem autorizacao explicita do usuario ("ate eu liberar"). Proximo passo
natural quando liberado: nova rodada de partidas reais do usuario (Imu) pra
validar se o comportamento do bot com Kid melhorou de fato, e retomar o
comparador de decisoes humanas pendente desde o bloco 140.

## 2026-07-14 (141) - Claude - CORRECAO ESTRUTURAL: posture() nunca recebia dado de deck algum (nem offline nem ao vivo, pra NENHUM deck)

**Contexto:** usuario expressou frustracao real e legitima -- "sinto que nada
do que fizemos cumpre os objetivos do projeto... se o bot trocar de deck ele
nao sabe jogar, nao da pra ficar consertando deck por deck". Pediu solucao
DEFINITIVA, nao mais um patch pontual. Investigacao (nao suposicao) achou a
causa: os consertos recentes (avaliar_carta/`_score_to_play` win-con bonus)
sao genericos no CODIGO (zero nome de carta) mas SO produzem efeito pra
decks com o padrao especifico que `compute_game_plan` reconhece (combo de
reanimacao) -- Kid (deck de Arthur nas 2 ultimas partidas, bot jogando)
nao tem esse padrao, entao nunca sentiu nenhum dos consertos.

**Achado MAIOR (nao era so isso):** `posture()` (o classificador aggressive/
control/midrange que JA EXISTE, ja bem desenhado, calibrado com decks reais
do Limitless, e alimenta o bloco de "Ajuste por postura" de `avaliar_carta`
+ `analysis_priority()` etc.) depende de `GameState.full_deck_census` --
campo que **NUNCA era populado em lugar nenhum do motor**, nem em
`OPTCGMatch.__init__` (offline/self-play/gauntlet/tunagem) nem em
`server.py._dto_to_gs` (ao vivo) -- SO em `replay_optcg.py`, uma ferramenta
de VISUALIZACAO isolada, nunca usada pelas decisoes de verdade. Resultado:
`posture()` SEMPRE caia no fallback `'midrange'`, pra QUALQUER deck,
offline E ao vivo, esta sessao inteira e todas as anteriores. Nao e "so
Imu" -- e um buraco estrutural que afetava TODAS as decisoes de TODOS os
decks, sempre.

**Fix (2 pontas, ambas triviais depois de achado o buraco):**
1. `OPTCGMatch.__init__`: popula `state_a.full_deck_census`/
   `state_b.full_deck_census` via `deck_census(cards_a/cards_b)` -- a
   decklist completa ja e conhecida ali, zero lookup necessario.
2. `server.py._dto_to_gs` (ao vivo): usa o MESMO lookup lider->`.deck` ja
   construido pro `OpponentModel` (bloco 137) -- extrai
   `sim_bridge.deck_cards_for_leader(leader_code)` (refatorado de
   `opponent_model_for_leader` pra reuso) e popula o census. Mesma
   aproximacao/ressalva de sempre: nao garante bater se o usuario
   customizar a lista, mas e a MESMA decklist ja usada em tudo mais.

**Nuance importante pro usuario saber:** o Kid.deck ESPECIFICO que esta no
banco classificou como **'control'** (curva media 2.6, mas 18% custo>=6
estoura o limiar), NAO 'aggressive' como a intuicao sugeria. Isso NAO
invalida o fix -- antes o campo simplesmente NUNCA recebia dado nenhum
(sempre None -> sempre midrange); agora recebe dado REAL, seja qual for o
resultado. Mas significa que o sintoma exato (board vazio, so lider
atacando) pode nao sumir so com isso -- pode precisar de investigacao
adicional especifica do Kid (ex: o bug do Black Rope Dragon Twister achado
no mesmo dia, ainda sem causa raiz fechada) ou reavaliar os limiares de
`deck_census.deck_profile()` pra esse deck em particular.

**Validado:** `smoke_fast` (32 checks, 1 novo dirigido: census populado nos
dois lados offline + pipeline live identico) + `smoke_test` amplo verdes.
Testado end-to-end (choose_action real com census populado, nao so
unidade). Server precisa reiniciar pra pegar o fix (nao fiz ainda -- proxima
acao).

**PROXIMO PASSO NATURAL (nao feito ainda):** medir se isso muda algo de
verdade — rodar `baseline_metrics.py` Imu vs Kid ANTES/DEPOIS pra ver se
`posture()` recebendo dado real move winrate/agressividade, e trazer o
usuario pra outra rodada de partidas reais (agora COM o fix) pra confirmar
ao vivo. Comparador de decisoes humanas (Imu) do usuario ainda pendente
(bloco 140), nao esquecer.

## 2026-07-14 (140) - Claude - MUDANCA DE METODO combinada com o usuario + fix do parser (snapshot vazio)

**Novo metodo de validacao (pedido do usuario 14/07):** em vez de caçar bug
log a log (o que temos feito ha varias sessoes), o usuario vai jogar 2
partidas pilotando o IMU ele mesmo (nao o bot) e mandar os logs. Objetivo:
simular as MESMAS partidas com o engine e medir se o bot teria tomado pelo
menos 80% das MESMAS decisoes que o usuario tomou -- so DEPOIS listar as
diferencas e decidir se regula o motor. Muito mais rigoroso que o que
vinhamos fazendo (achar 1 decisao ruim por vez via inspecao manual).

**Pre-requisito resolvido antes do usuario jogar:** `parse_combat_log.py`
tinha um bug real que inviabilizava a comparacao -- a maioria dos
snapshots (Hand/Board/Trash/Life) do jogo vem com TAG VAZIA (`[] Hand:
[...]`, nao `[You] Hand:`), e a regex antiga (`(.+?)`, 1+ char) nunca
casava tag vazia, entao o campo `snapshot` de cada turno saia SEMPRE
vazio (`{}`), inviabilizando reconstruir o estado do jogo turno a turno.

**Fix (2 partes):**
1. `RE_HAND/BOARD/TRASH/LIFE`: `(.+?)` -> `(.*?)` (aceita tag vazia).
2. Atribuicao de DONO pra tag vazia: tentei por POSICAO (par alterna
   You/Opponent) primeiro -- **deu resultado INVERTIDO num teste real**
   (o par logo apos o mulligan sai numa ordem, os pares seguintes saem na
   ordem OPOSTA -- nao e fixo). Fix real: `_build_known_codes` escaneia
   TODAS as linhas com tag REAL (Deploy/Draw/Attack, que sempre tem tag)
   e monta o conjunto de codigos de carta ja vistos de cada lado; blocos
   de snapshot sem tag sao atribuidos por CRUZAMENTO (qual lado tem mais
   codigos em comum com o bloco), com alternancia posicional so como
   fallback de ultimo recurso (empate/bloco sem cruzamento nenhum).

**Validado:** testado em 3 logs reais (10/10 turnos com snapshot em cada,
antes 0/10) — atribuicao conferida manualmente (You=Kid com cartas OP10-xxx,
Opponent=Imu com cartas OP13-xxx, batendo com o cabecalho). `smoke_fast`/
`smoke_test` (nao tocam este arquivo, mas rodados por seguranca) verdes.

**PROXIMO PASSO (em andamento):** construir o comparador propriamente dito
-- dado um log real onde o USUARIO pilotou o Imu, reconstruir o GameState
antes de cada decisao dele (play/attack/etc, usando os snapshots agora
confiaveis) e perguntar ao engine o que ELE escolheria no mesmo ponto,
comparando com o que o usuario realmente fez. Ainda nao commitado/pronto
nesta sessao -- aguardando os 2 logs do usuario pra validar contra caso
real.

## 2026-07-14 (139) - Claude - 3a copia do bug de win-con achada (a REAL causa do combo nunca ativar) + blocker-save agora desconta on_ko/ataques restantes

Log `Eustass.Captain.Kid-Y_x_Imu-B_2026-07-14T14.16.10`. Usuario confirmou
Shalria resolvida (bloco 138) e trouxe 2 pontos NOVOS e concretos.

**1. Sequenciamento com 10 DON — investigado, achou o bug REAL por baixo.**
Reproduzi o cenario exato (10 DON, Five Elders + Nosjuro + Ju Peter na mao,
fuel no trash, Empty Throne em campo) rodando o `choose_action` (busca ao
vivo) passo a passo de verdade. Achado: a Empty Throne jogava **Ju Peter**
(searcher generico) em vez da **Five Elders** (a bomba) -- e essa e a causa
raiz real de "nunca ativa o combo", nao prioridade de ataque como eu supus
antes. Rastreei ate `_score_to_play` (dentro de `_execute_step`, a funcao
que EXECUTA de verdade qualquer `play_card` de QUALQUER trigger, incl.
`activate_main` da Empty Throne) -- **3a copia INDEPENDENTE do mesmo bug**
ja corrigido 2x este mes (`avaliar_carta` bloco 136, `order_target_candidates`
/own_hand bloco 136): sem nocao de game_plan, um searcher (+40 de flag
is_searcher) batia a bomba (12000 poder, zero flags) por larga margem
(Ju Peter=45 vs Five Elders=12). FIX: mesmo bonus (+90 se
`code==game_plan.win_con_code`) aplicado em `_score_to_play`. Resimulei o
turno INTEIRO pos-fix: Empty Throne -> Five Elders em campo -> ativa a
PROPRIA habilidade no PASSO SEGUINTE (reanima 5 do trash, sacrifica a si
mesma) -> Nosjuro jogado -> ataca. O combo agora DISPARA -- antes nunca
disparava, ponto final. Sequenciamento "atacar com o board ANTES de
sacrifica-lo" (o pedido especifico do usuario) ainda nao e perfeito (o
board reanimado entra e ataca no MESMO turno sem extrair valor do board
ANTERIOR primeiro), mas o bloqueio raiz (combo nunca executava) esta
resolvido -- refinamento de ordem fica pra sessao futura, ja documentado.

**2. Salvar blocker com counter — desconta on_ko_value + ataques restantes
do oponente.** `select_counter_cards`'s ramo `defender_char` (bloco 09/07)
comparava `char_value_score(defender) > gasto` — bruto, sem descontar o que
a carta DARIA se morresse (Warcury tem on_ko: draw 1) nem considerar se o
oponente ainda tem mais atacantes ativos este turno (gastar o counter agora
compete com precisar dele de novo). FIX: `valor_liquido = char_value_score -
on_ko_value`, com desconto proporcional a `min(ataques_restantes,2)` quando
o oponente ainda tem atacantes ativos alem do atual. Testado: Warcury (net
95) continua salvo mesmo com 2 atacantes restantes (desconto de 30 nao vira
a decisao — corpo valioso o suficiente), mecanismo confirmado numericamente
sensivel aos dois fatores.

**Validado:** `smoke_fast` (30 checks, 2 novos dirigidos) + `smoke_test`
amplo verdes. Server reiniciado.

## 2026-07-14 (138) - Claude - DOIS bugs REAIS achados e corrigidos: deadlock do ciclo do lider + DON nunca reservado pra ativar a win-con

Log `Eustass.Captain.Kid-Y_x_Imu-B_2026-07-14T13.08.24`. Usuario, com razao,
apontou que "Shalria nunca trashada" e "Five Elders desceu mas nunca ativou"
JA TINHAM SIDO REPORTADOS e continuavam sem evoluir. Desta vez a causa raiz
de CADA UM e diferente do que foi mexido antes (blocos 131-133 mexeram em
QUAL carta trashar; o bug real era o CICLO NUNCA RODAR) — achados via
reproducao direta, nao suposicao.

**1. DEADLOCK do ciclo do lider (CONFIRMADO, causa raiz da Shalria nos
blocos 131-138):** `_should_activate_main` (custo `trash_char_or_hand` do
lider Imu) tem um guard "adia ciclo do lider: atacar com chars ativos antes
de trashar" que so checava `character_can_attack_now` (LEGALIDADE — pode
atacar?), nunca se atacar VALE A PENA. Um corpo de 0 poder (Shalria, on-play
ja gasto) e "tecnicamente ativo" PRA SEMPRE — o bot corretamente NUNCA ataca
com ela (0 poder nao conecta nada), entao ela nunca fica restada, entao o
guard NUNCA libera, entao o lider trava o ciclo pelo RESTO DA PARTIDA.
Confirmado por reproducao direta: `_should_activate_main` retornava
`(False, 'adia ciclo do lider...')` com Shalria parada no campo, MESMO com
mao pagavel. No log real: leader ability usada exatamente 2x (turnos 1-2,
ANTES da Shalria entrar) e nunca mais nos 8 turnos seguintes — Shalria
sentada o jogo inteiro. FIX: os dois guards ('trash_char' e o do lider)
agora exigem `power > 0` alem de `character_can_attack_now` — corpo morto
nunca justifica adiar o ciclo. Reproduzido pos-fix: retorna True.

**2. DON nunca reservado pra ATIVAR a win-con ja em campo (causa real do
"Five Elders desceu e nao ativou"):** `_don_livre_for_plan` (a reserva de
DON pro plano do turno, usada tanto no simulador quanto ao vivo via
`sim_bridge.don_for_attack`) SO reservava DON pra acoes `'play'` (jogar
carta), NUNCA pra `'activate'` (ativar habilidade de carta ja em campo).
Investigacao do log real: turno 5, Five Elders foi jogado via Empty Throne
(10 DON), mas o Activate:Main dele (rest_don:1 + trash 1 da mao -> reanima
5 do trash) SEMPRE perdia a competicao por DON contra margem de ataque
(Warcury/lider atacando) — nao porque o score fosse baixo por si so (o
score de 118 refletia corretamente que so 3 dos 5 Elders estavam no trash
naquele momento, nao um bug de calibracao), mas porque o DON que faltava pra
pagar o rest_don:1 da ativacao ERA CONSUMIDO PRIMEIRO pelos ataques, sem
NENHUMA reserva protegendo. FIX: `_don_livre_for_plan` agora reserva DON
tambem pra acoes `'activate'` com score>=0 na lista (mesmo padrao ja usado
pra 'play' — le o custo real via `get_card_effects(...)['activate_main']
['costs']`). Reproduzido: cenario com Five Elders em campo + fuel no trash +
4 DON -> `don_livre` cai de 4 pra 3 (1 protegido pro activate).

**Ambos sao fixes GENERICOS** (zero nome de carta — qualquer deck com corpo
0-poder ou win-con com Activate:Main de custo DON se beneficia) e vivem no
motor unico (`decision_engine.py`, `OPTCGMatch`/`_should_activate_main` e
`_don_livre_for_plan`). Hook sem-dois-motores passa limpo (mudanca so no
proprio decision_engine.py).

**Validado:** `smoke_fast` (26 checks, 2 novos dirigidos reproduzindo os dois
bugs) + `smoke_test` amplo verdes. Server reiniciado.

**Nota de honestidade pro usuario:** os blocos 131-133 mexeram na ORDEM de
quem trashar quando o ciclo RODA — mas nunca tinham verificado se o ciclo
CHEGAVA A RODAR depois do primeiro uso. Esse era o gap real. Peço desculpa
pela demora em achar — a diferenca desta vez foi reproduzir o
`_should_activate_main`/`_don_livre_for_plan` DIRETO com o estado do jogo
real, em vez de só olhar os logs de decisão de fora.

## 2026-07-14 (137) - Claude - ITEM 3 LIGADO AO VIVO: busca de resposta do oponente no /decide

Log `Eustass.Captain.Kid-Y_x_Imu-B_2026-07-14T12.39.23`: usuario ganhou facil,
bot "sem counter na mao". Investigacao (sem fix pontual — achado estrutural):
o bot atacou 6x, so 1 conectou (5 bloqueadas/counteradas), tomou 4 hits — nao
foi ma gestao de recurso (os counters usados foram TODOS justificados por vida
critica), foi FALTA DE PRESSAO: o mesmo padrao "ataca seco -> ele countera
barato" que o item 3 (bloco 134) foi desenhado pra resolver, mas que so
existia OFFLINE ate agora. Usuario pediu pra ligar ao vivo.

**O que destravava (documentado no bloco 134):** `OpponentModel` (mao/vida
ficticia do oponente) exige a decklist REAL dele; o match ao vivo (`server.py
_get_match`) usa deck PLACEHOLDER pros dois lados. Sem decklist real, ligar a
busca daria previsao de mao LIXO.

**Solucao (pedido explicito do usuario, aproximacao deliberada):** os decks de
teste em `DECKS_DIR` sao nomeados por arquetipo (Kid.deck, Krieg.deck...) — os
MESMOS que o usuario sempre usa pra jogar contra o bot, e os MESMOS que a
tunagem/gauntlet offline ja usa. Lookup por CODIGO DO LIDER acha o `.deck`
correspondente. Nao e garantido bater se o usuario customizar a lista, mas e
infinitamente melhor que nao ter busca nenhuma.

**Implementado em `sim_bridge.py` (transporte puro, decisao 100% no motor):**
- `opponent_model_for_leader(leader_code)`: lookup lider->`.deck` (indice
  lazy, 22 lideres encontrados nos 31 arquivos) + `OpponentModel` cacheado.
  Lider desconhecido -> None (busca fica indisponivel, NUNCA quebra).
- `choose_action` ganhou busca: coleta ate 2 candidatos elegiveis (era so o
  1o); **fallback seguro IMEDIATO** — `result[0]` = candidato top ANTES de
  tentar a busca, entao mesmo se o timeout cortar a espera pela busca, o
  caller (server.py, que trata `None` como "encerra o turno" — pior que o
  score imediato de sempre) ja tem uma acao valida. Se ha >1 candidato E
  modelo disponivel, refina via `match._simulate_sequence_values` (MESMO
  metodo do motor usado no `main_phase` offline — minha linha ate o fim do
  turno + resposta do oponente + `_evaluate_state_v2`), K=2/S=2 (menor que
  offline K=3/S=3 -- orcamento e por ACAO, nao por turno inteiro).
- **Custo medido:** 0.1s (cenario simples) a 0.55s (board CHEIO late-game, o
  mesmo cenario que custou 60-70s/TURNO no profiling offline do bloco 134) —
  bem dentro do timeout de 3s do `/decide`. Diferenca: offline simula um TURNO
  INTEIRO (varios pontos de decisao); ao vivo e UMA acao por chamada.

**Hook sem-dois-motores:** `_simulate_sequence_values`/
`_generate_and_score_actions`/`OpponentModel` adicionados ao
`ENGINE_TOUCHPOINTS` (`scripts/hooks/pre-commit`, sincronizado em
`.git/hooks/`) — essas chamadas ja existiam (nao mudaram), so ficaram
invisiveis ao scanner por hunk (`-U0` corta contexto nao-modificado).

**Validado:** `smoke_fast` (24 checks, 3 novos: lookup real do Kid.deck,
fallback None em lider desconhecido, `choose_action` com busca retorna acao
valida) + `smoke_test` amplo verdes. Testado end-to-end (funcao real, nao so
unidade): board simples 0.1s, board cheio 0.55s, ambos escolhendo acao valida
e a busca REFINANDO a escolha (score imediato != valor simulado, log
`[ENG] busca refinou` confirma). Server reiniciado.

**PENDENTE (proximo teste ao vivo do usuario):** confirmar que o `/decide`
responde a tempo em partida real (nao so cenarios sinteticos) e que a
qualidade de decisao melhora (mais ataques conectando, menos ataque seco).

## 2026-07-14 (136) - Claude - CRITICO resolvido: win-con nao competia no avaliar_carta AO VIVO

Log `Eustass.Captain.Kid-Y_x_Imu-B_2026-07-14T12.02.31` (usuario testou o
popup P1/P2 — funcionou). 4 reports; 2 fixes reais, 1 investigado e explicado
(nao e bug), 1 e consequencia do mesmo root cause do 1o fix.

**1. CRITICO (raiz do "bot nao faz o combo" que persiste desde blocos 121+):**
survivor chegou aos 10 DON (bloco 131 funcionou) mas jogou Nosjuro em vez de
Five Elders (OP13-082) via Empty Throne. Causa raiz: **`avaliar_carta` — a
funcao que decide QUAL carta jogar em TODO o caminho AO VIVO — nao tinha
NENHUMA nocao de game_plan/win-con**, diferente de `_trash_value` (que ja
protegia a bomba no custo de trash desde 09/07). Um corpo mais barato com
counter alto (Nosjuro, 1000 counter) podia pontuar ACIMA da bomba (12000
poder) em vida baixa (multiplicador de panico do counter na formula existente)
— e mesmo em vida saudavel a diferenca era pequena. **Achado importante:**
`wincon_ready`/`survival_premium` (blocos 130-131) SO valem no simulador
OFFLINE (`_evaluate_state_v2`, usado por `main_phase`) — o caminho AO VIVO
(`choose_action`) nunca chama isso, decide so por `avaliar_carta`/
`_score_play_action` (confirmado ao investigar o item 3 — `/decide` nao tem
NENHUM lookahead). Ou seja, meu trabalho de sobrevivencia ate 10 DON ajudou
(via `avaliar_carta`? nao — via outros termos), mas a PARTE FINAL do combo
(jogar a bomba) nunca foi protegida no caminho que o bot realmente usa ao
vivo. FIX: `avaliar_carta` ganha +90 quando `card.code == game_plan.
win_con_code` (mesmo raciocinio de `_trash_value`, aplicado ao lado de
JOGAR). Testado no PIOR CASO (vida=1, onde o counter da Nosjuro recebe o
maior multiplicador): Five Elders ainda vence (165 vs 100). Tambem corrigi
`order_target_candidates`/`own_hand` (play-from-hand, ex: Empty Throne "play
1 five elders da mao"): usava `engine.avaliar_carta` (contaminado por
affordability) em vez de `engine_busca` (DON-neutro) — mesmo padrao ja
corrigido pro `top_deck` search em 09/07, nunca estendido pra este caso. Nao
foi a causa PRINCIPAL desta partida (DON=10 ja cobria ambas as cartas), mas e
correcao real e generica (protege quando DON estiver curto).

**2. Debuff [When Attacking] mirava alvo errado (Nosjuro atacando Law 9000 com
7000 de poder, debuffou Hawkins — sem ligacao com o combate).** Causa raiz:
`order_target_candidates`'s ramo `actor_debuff_swing` ignorava
`attacker_power`/`defender_uid` (que JA chegavam populados — confirmado no
`[TGT]` do session log: `atk=7000 def=360`) e so olhava "maior ameaca ATIVA"
generica. FIX: nova regra no motor unico, `DecisionEngine.
debuff_flips_attack_in_my_favor` (espelho de `buff_wins_combat`: eu sou o
ATACANTE, empate ja me favorece, entao debuffar o DEFENSOR do meu ataque pra
`<= meu poder` vira o combate) — prioridade maxima quando o alvo e o defensor
do ataque em andamento E o debuff vira o resultado. `order_target_candidates`
so chama, sem regua propria (hook sem-dois-motores exigiu atualizar
`ENGINE_TOUCHPOINTS` em `scripts/hooks/pre-commit` — mantido em sincronia
com `.git/hooks/pre-commit`, acao sancionada pelo proprio comentario do hook).

**3. Turno 3, mao "gorda" (6 cartas), nao counterou um empate 5000v5000 (regra
do jogo: empate favorece o ATACANTE) — INVESTIGADO, NAO E BUG.** `pick_counters
(needed=1)` escolheu a carta mais barata disponivel (Warcury, pitch=75.5), mas
`valor_vida` (vida 4, folga de mao pequena) so autorizava ate 20 — recusou.
Mecanicamente correto: counter e por CARTA INTEIRA (nao ha opcao mais barata
que "sacrificar o corpo mais fraco disponivel"), e a mao nao tinha NENHUMA
carta "lixo" pra pitchar de graca (todos Celestial Dragons uteis). A
calibracao (vida 4+ = golpe barato de tomar, nao gasta corpo bom por 1 vida)
segue a regra do usuario (ganho liquido caso a caso, memoria
`feedback_ganho_liquido_caso_a_caso`) — NAO mudei sem evidencia clara de erro.
Se o usuario achar que empates especificamente deveriam quase sempre counterar
(needed minimo = 1), e uma decisao de DESIGN a validar, nao um bug corrigido
sozinho.

**4. "Bot esquece de jogar outros Elders, ex: Jupiter que bufa todo mundo" —
NAO ha carta "Jupiter"/buff-geral entre os 5 Elders (Saturn/Mars/Warcury/
Nusjuro/Ju Peter — nenhum buffa aliados; cada um tem IMUNIDADE INDIVIDUAL
condicional a trash_gte:7, que com VARIOS em campo simultaneamente PARECE um
buff coletivo). E CONSEQUENCIA do item 1 (combo nunca executa -> nunca ha
"varios Elders em campo" pra sentir esse efeito), nao um bug separado.

**Validado:** `smoke_fast` (21 checks) + `smoke_test` amplo verdes; hook
sem-dois-motores atualizado e passando. Server reiniciado com os 2 fixes.

## 2026-07-14 (135) - Claude - turn order: causa raiz FINAL + toggle P1/P2 + popup no bot

**Causa raiz confirmada pelo USUARIO (fecha a investigacao dos blocos 122/123/
131/133/134):** Solo vs Self **nao tem tela de cara-ou-coroa** — nao e o bot
suprimindo nada, nao e o dado sendo perdido; o MODO simplesmente nao pergunta
1o/2o (so faz sentido decidir isso contra um oponente de verdade). P1/P2 sao
fixos desde o inicio da partida. **NAO HA MAIS O QUE INVESTIGAR NO ENGINE
sobre isso.**

**Feature pedida pelo usuario:** como nao da pra escolher 1o/2o por tela, a
unica forma de TESTAR o bot nos dois papeis e trocar qual LADO (P1/P2) ele
controla. Implementado no plugin (`BotDriver.cs`/`TurnOrderPatch.cs`, camada
olhos/maos — zero logica de carta, so troca QUAL jogador o driver le/clica):

1. `BotDriver.BotPlayerIndex` virou `static` (era `const`) — mutavel em tempo
   real. `TurnOrderPatch.cs` foi corrigido pra ler o MESMO campo (tinha um
   `const=0` DUPLICADO e proprio — ficaria dessincronizado assim que o toggle
   fosse usado, achado ao consolidar).
2. **Atalho Shift+P**: troca o bot entre P1/P2 a qualquer momento (mesmo
   padrao do Shift+B ja existente pra ligar/desligar).
3. **Popup permanente** (canto superior esquerdo, `OnGUI`): mostra `[Bot] P1/P2
   — ATIVADO/DESATIVADO` + lembrete dos atalhos. Precisou adicionar a
   referencia `UnityEngine.IMGUIModule` no `.csproj` (DLL ja existe na
   instalacao do jogo, so faltava referenciar).

**Build:** `dotnet build` 0 erros, DLL copiada automaticamente (timestamp
11:39). **Pendente: usuario reabrir o jogo** (DLL nova) e testar Shift+P +
o popup.

## 2026-07-14 (134) - Claude - ITEM 3 do plano: busca de resposta do oponente (nucleo, offline)

Decidido com o usuario 14/07: PAUSAR whack-a-mole de leak, atacar o lever
estrutural. Detalhe completo/tecnico em
[PLANO_AVALIACAO_E_BUSCA.md secao 3](scriptis_da_ia/PLANO_AVALIACAO_E_BUSCA.md).
Resumo pra quem retomar:

**O que foi construido:** `OPTCGMatch._play_turn_greedy` (motor unico, novo
metodo) joga o turno de resposta do oponente com o PROPRIO engine dele, modo
GULOSO (sem Monte Carlo, sem aninhar `main_phase` — evita explosao). Ligado em
`_simulate_sequence_once`: depois de simular MINHA linha ate o fim do turno,
simula a resposta INTEIRA dele antes de avaliar o estado — e o que faz "ataquei
seco -> ele countera barato e devolve" virar visivel pra `evaluate_state`, em
vez de so a foto no fim do meu turno (a passividade sistemica do marco-zero,
`don_por_atk` baixo). Flag `USE_OPPONENT_RESPONSE_SEARCH=True`.

**Custo: achado e corrigido na mesma sessao.** 1a versao explodiu — 1 partida
foi de 5s pra 147s (perfilado com cProfile: O(board²) por passo de acao-
geracao, ao quadrado por ter os DOIS turnos simulados, board cheio no late-
game). Cortado pra K=3/S=3 (era K=6/S=6) + max_steps=6 na resposta — EXATAMENTE
os numeros que o proprio texto do plano ja recomendava ("top-K≈3... S≈3
amostras"), so nao estavam sendo respeitados. Resultado: ~5-15s/partida,
comparavel ao baseline sem a busca. K=6/S=6 (ja validado 13/07) continua
valendo com a flag desligada.

**IMPORTANTE — achado lateral que muda o proximo passo:** o caminho AO VIVO
(`/decide` -> `sim_bridge.choose_action`) **nao tem NENHUM lookahead hoje** —
decide so pelo score imediato de `_generate_and_score_actions`, nunca chamou
`_simulate_sequence_once`/`main_phase` (esses so rodam dentro do `simulate()`
do self-play/gauntlet offline). E TAMBEM por isso a busca nova NAO foi ligada
ao vivo ainda: o `OpponentModel` (mao ficticia do oponente) exige a decklist
REAL dele, e o `OPTCGMatch` do server ao vivo usa um deck PLACEHOLDER pros
dois lados (so pra ter a maquinaria) — ligar ali leria previsao de mao LIXO.
Pendencia clara pro proximo passo: decklist real do oponente server-side
(lookup leader->arquivo .deck existente no banco, ex. Kid.deck/Krieg.deck ja
batem com o que os humanos jogam nos testes) ANTES de religar ao vivo.

**Validacao:** smoke_fast (19 checks, 3 novos dirigidos: resposta nao quebra,
joga carta real, detecta letal do oponente) + smoke_test amplo verdes.
`baseline_metrics.py` roda ponta a ponta sem excecao. NAO validado por
winrate ainda (n pequeno e ruidoso, mesma ressalva dos blocos 131-133) — isso
e trabalho do item 5 (gauntlet n=50).

**PROXIMO (nesta ordem):** (a) decklist real do oponente ao vivo -> religar a
busca no `/decide`; (b) item 4 (defesa pela mesma regua, barato, depois disto
estabilizar); (c) gauntlet n=50 pra validar ganho de winrate de verdade.

## 2026-07-14 (133) - Claude - Shalria da MAO protegida (trash-filler) + turn order reinvestigado

**Shalria na MAO (FIX, engine):** o efeito dela (on_play trash_rest+trash_from_hand)
ENCHE o trash -> rumo ao trash_gte 7 (imunidade CD + combo). `_trash_value` agora
protege QUALQUER character cujo on_play tem acao de trash-fill enquanto
`len(trash) < game_plan.trash_target` (Shalria _trash_value 186->236 com trash<7).
Generico (game_plan + acoes do banco, zero nome de carta). Complementa o fix do
bloco 132 (Shalria MORTA no CAMPO trasha 1o) -- agora os dois lados certos:
campo morta=descartavel, mao=jogar pra encher o trash. Check no smoke_fast.

**TURN ORDER reinvestigado (log 02.34.18) -- NAO e o bot matando a escolha:** o
usuario relatou que a opcao de 1o/2o nao aparece nem pra ele e suspeitou do bot.
Evidencia (LogOutput.log): o codigo de turn-order do bot (BotDriver:97 +
TurnOrderPatch) so dispara em `Start_WaitOnTurnOrder`, que SO existe pra quem
GANHA o dado; nos 3 logs esse estado NUNCA ocorreu no cliente do bot (vai direto
pro mulligan) e NENHUM log de `turn_order patch`/`ganhou o dado` aparece. Ou
seja, o bot NAO toca na escolha. A opcao nao aparecer parece comportamento do
modo (Solo vs Self auto-atribui / o dado decide sem prompt), nao o plugin. NAO
mexer as cegas (risco de quebrar mulligan/fluxo que funcionam). Se persistir,
DEBUG AO VIVO (Shift+B pra pausar o bot no game-start e observar a tela). Pista
solta a investigar live: linha 20 do log = `[Bot] alvo de efeito: OP13-099`
(clique de efeito no game-start, antes do mulligan) -- origem nao esclarecida.

**PROXIMO: PAUSAR whack-a-mole, COMECAR ITEM 3 (busca prof.2)** -- decidido com o
usuario 14/07. Meta: jogo DISPUTADO vs humano (nao ganhar todas). Ver
PLANO_AVALIACAO_E_BUSCA secao 3.

## 2026-07-14 (132) - Claude - Shalria dead-weight robusto (log 02.34.18) + nota estrategica

Log `02.34.18` (Imu vs Kid): o fix da Shalria do bloco 131 FUNCIONOU parcial
(lider trashou a Shalria #1, linha 384), mas uma 2a copia RECEM-JOGADA ficou no
campo -- o lider trashou a Mary Geoise (stage redundante da MAO) em vez dela. 2
causas: (a) a Shalria #2 tinha `just_played=True`, e a guarda anterior protegia
just_played; (b) comparacao cruzava duas reguas (char_value_score no campo vs
_trash_value na mao) e o stage pontuou mais baixo. FIX: toda a valoracao do
custo-de-trash-de-campo virou `DecisionEngine.trash_cost_board_perda(card,p)`
(motor unico) -- dead-weight = sem defesa (0 poder/sem blocker) E sem efeito
ATIVO futuro (when_attacking/activate_main), REGARDLESS de just_played (o on-play
ja resolveu na entrada) -> perda -999, trasha antes de qualquer carta da mao.
Generico (checa efeitos do banco, zero nome de carta). sim_bridge so chama.
Reproduzido (Shalria just_played -> trasha antes de Mary Geoise) + smoke_fast.

**TURN ORDER -- ENCERRADO (nao reabrir):** o bot vai 1o porque PERDE O DADO. O
estado `Start_WaitOnTurnOrder` so existe pra quem GANHA o dado; nos 3 logs o bot
perdeu, foi direto pro mulligan. Nem o TurnOrderPatch nem heuristica do engine
mudam isso -- o dado e do jogo, o vencedor (humano) escolhe 2o (vantajoso) e
deixa o bot 1o. NAO E BUG. Parar de investigar turn order.

**NOTA ESTRATEGICA (competitividade vs humano):** o usuario quer o bot
COMPETITIVO contra humanos (proxy de qualidade do engine = objetivo). O
whack-a-mole de leaks (Never Existed, Ground Death, Shalria...) tem retorno
DECRESCENTE -- e exatamente o que o PLANO_AVALIACAO_E_BUSCA foi criado pra
escapar. O lever estrutural real e o **item 3 (busca prof.2 / resposta do
oponente)**: e o que para o bot de jogar no vacuo / atacar em counter / nao ver
letal. Proximo passo recomendado = ATACAR O ITEM 3, nao mais patch de leak.
Ceiling honesto: info assimetrica (bot nao ve a mao do humano) + humano se
adapta ao padrao do bot limitam "competitivo", mas da pra fechar MUITO o gap.

## 2026-07-14 (131) - Claude - 3 leaks taticos (log 01.23.31) + survival opp-aware

Partida ao vivo `Imu-B_x_Kid_01.23.31` (usuario amassou o bot). Confirmado:
DLL atual (`Harmony PatchAll executado` no log), server meu atendeu. Turn order:
bot foi 1o porque PERDEU O DADO (`Start_WaitOnTurnOrder` nunca ocorreu) -> NAO e
bug do engine, o `turn_order patch` nao tem o que interceptar quando perde o
dado. 3 leaks corrigidos + 1 termo novo (todos com check no `smoke_fast.py`):

1. **Never Existed "do nada" (FIX):** ativou o [Main] `ko opp_stage` sem stage
   do oponente = jogou a carta no vacuo E queimou o [Counter] +4000. A
   viabilidade (`_step_is_viable`) ja retornava False, mas o gate em
   `_score_play_action` era so -120 (mole). Agora **bloqueio DURO** (return
   -999) pra EVENTO cujo [Main] nao produz nada. Check: "Never Existed no
   vacuo e bloqueio duro".
2. **Ground Death alvo errado (FIX):** counter +4000 foi no corpo ATIVO mais
   forte em vez do lider sob ataque (empate Kaido 5000 vs lider 5000 = atacante
   vence). Causa: `order_target_candidates` (sim_bridge ~1067) usava
   `p < maior_ameaca <= resultante` (empate nos dois lados); a regra irma usa
   `p <= X < resultante`. Corrigido pra `p <= maior_ameaca < resultante`.
   Reproduzido (corpo ativo 8000 -> buff ia nele) e check no smoke_fast.
3. **Shalria nao trashada no draw (FIX):** o +40 "ultimo corpo" protegia a
   Shalria (0 poder, on-play gasto) que NAO defende nada -> lider trashava fuel/
   mao. Agora o +40 so vale se o corpo REALMENTE defende (poder>0 ou blocker).
   Ordem pos-fix: Shalria(morta)->MarcusMars(fuel)->Saturn->FiveElders. Valiosos
   seguem protegidos. Check no smoke_fast.
4. **Sobrevivencia ciente do plano (TERMO NOVO, prior gated):** pedido do
   usuario -- se a win-con e combo de 10 DON, sobreviver ate la. `evaluate_state`
   ganha premio na MINHA vida quando: win-con caro (don_target>=6) + nao
   disparavel ainda (don<target) + vida baixa (panico<=3) + **oponente NAO e
   controle-dominante** (gate por arquetipo do opp, plano item 2 ponto 5). O
   gate e a salvaguarda: vs CONTROLE durdlar e ruim (Krieg feriu 0.53->0.27 sem
   gate), entao o premio DESLIGA vs controle e so liga vs aggro (Kid subiu).
   Peso `survival_premium`=15 (prior pendente tunagem n=50).

**SEM DOIS MOTORES (regra do usuario reforcada 14/07):** os fixes 2 e 3 NAO
duplicam regua no sim_bridge -- a aritmetica de combate virou metodo GENERICO no
motor unico: `DecisionEngine.buff_wins_combat(def,threat,buffed)` (regra do
empate do OPTCG, usada pelas DUAS checagens de buff, consolidando a divergencia
que era a raiz do bug), `body_provides_defense(card)` e `would_lose_last_defender
(p,card)`. `order_target_candidates` (sim_bridge) so CHAMA esses metodos, sem
comparacao numerica propria. Tudo generico (so numeros/flags, zero nome de
carta) = qualquer deck. pre-commit hook (sem-dois-motores) passa limpo.

**RESSALVA DE MEDICAO (importante):** o A/B n=15 seed=1 OSCILOU MUITO entre runs
(Krieg 0.53/0.27/0.33/0.20) mesmo com PYTHONHASHSEED=0 -- n=15 e ruidoso demais
pra validar termos de eval. Os 3 FIXES sao validados por TESTES DIRIGIDOS
deterministicos (nao dependem do winrate). O survival e prior gated (seguro por
construcao vs controle), a validar no gauntlet n=50 do item 5. NAO confiar em
winrate n=15 pra decidir termo de eval daqui pra frente.

**ESTADO:** smoke_fast 12->15 checks, todos verdes. Server precisa REINICIAR
(mudou decision_engine/sim_bridge). DLL inalterada (so Python). Pendente = novo
teste ao vivo. Proximo estrutural: item 3 (busca prof.2) = o que de fato para
"joga no vacuo/ataca em counter".

## 2026-07-14 (130) - Claude - win-con "arma carregada" na eval + commit unindo sessoes

**Contexto:** sessao paralela a do Codex (blocos 125-129). Este commit UNE o
trabalho nao-commitado das duas: `wincon_ready` (meu) + TurnOrderPatch/Rush/
smoke_fast (Codex). Verifiquei que coexistem — `smoke_fast.py` 12/12 verde com
tudo junto, nada conflitou. O Codex ate REFINOU minha logica (trocou
`don_available`→`don_on_field()` no ramp da win-con, com razao: DON anexado
volta ativo no refresh, entao `don_available` subconta a linha no fim da sim).

**O que eu entreguei (item 1 do plano — win-con):**
- `_evaluate_state_v2` agora valoriza a win-con JOGAVEL ("arma carregada"):
  peca-motor na MAO + fuel no trash + progresso de DON rumo ao custo. Peso
  `wincon_ready`=20 (prior tunavel, item 5). Generico via perfil (eixo
  bottleneck ja tinha engine_card.custo + fuel), zero nome de carta. Ataca o
  CRITICO reportado ao vivo (Five Elders/OP13-082 ficou na mao a partida
  inteira, fuel pronto, combo nunca valorizado). A/B n=15 seed=1: Imu vs Krieg
  0.13→0.53, vs Kid 0.40→0.33 (ruido). Sem regressao real.
- ANTES disso (commit f90a77d, ja no git): log de DON anexado pelo bot no
  combat log (LogLine Log.AttachDonMulti) — don_por_atk agora mensuravel.
  Confirmado AO VIVO 13/07 (log Imu vs Kaido): 5 linhas `[You] Attach` (antes 0).

**Achados ao vivo 13/07 (log Imu-B_x_Kaido-P_21.01.22) que guiam o proximo passo:**
1. **Win-con precisa de POSTURA DE SOBREVIVENCIA (pedido do usuario 14/07):** se
   o plano e combo com 10 DON, o bot tem que SOBREVIVER ate os 10 (ou fechar
   antes) — nao pode perder todas as vidas antes. Hoje: eval valoriza a arma
   carregada (meu) + sequenciamento (Codex), FALTA a defesa/durdle ciente do
   game_plan quando falta DON. PROXIMO passo do fio da win-con.
2. **Ground Death (OP14-096) alvo errado — BUG ABERTO:** counter buff +4000 foi
   no Kuma (parado) em vez do lider Imu que LEVAVA o golpe do Kaido (5000 vs
   5000, empate = atacante vence). Suspeito: `order_target_candidates`
   (sim_bridge) regra do lider defensor usa `p < maior_ameaca` (ESTRITO) na
   linha ~1060 — deveria ser `<=` (empate vai pro atacante, buff salva). A
   regra irma (linha ~1039) ja usa `<=`. NAO reproduzi ate o fim (classifier
   caiu). O smoke_fast do Codex cobre o MODO MAIN (nao gastar DON no negate),
   nao o counter-buff-target — bug distinto, ainda aberto.
3. **turn_order:** o bot foi PRIMEIRO porque PERDEU o dado (estado
   `Start_WaitOnTurnOrder` nunca ocorreu no LogOutput.log — so aparece pra quem
   ganha o dado). Mulligan DID rodar (KEEP, engine-reasoned). O TurnOrderPatch
   do Codex so dispara se esse estado ocorrer → teste ao vivo vai revelar se o
   patch pega (aparece `[Bot] turn_order patch`) ou se e sempre die-loss.

**ESTADO:** server Python reiniciado (8765 ok, session_2026-07-14T01.01.43.log);
DLL no jogo atual (build 01:02: TurnOrderPatch + PatchAll log + DON log);
smoke_fast 12/12. **Pendente = teste ao vivo do usuario** conferindo
`[Bot] Harmony PatchAll executado` + `[Bot] turn_order patch` no LogOutput.log.

## 2026-07-14 (129) - Codex - Rush condicional antes do campo + Jinbe OP11-031

**Contexto:** o usuario apontou dois casos que o engine precisava diferenciar:
`OP13-080` Nosjuro deve ser reconhecido com Rush condicional ainda na mao
quando `trash_gte: 7`, e `OP11-031` Jinbe (custo 6 do deck `jimbe.deck`) nao
usa a palavra `[Rush]`, mas seu `[Activate: Main]` permite que um Fish-Man /
Merfolk recem-baixado ataque Characters naquele turno.

**Fix feito:**
- `decision_engine.py`: `get_card_effects()` agora enriquece lacunas do
  `card_effects_db` usando texto ja presente no `card_analysis_db`. Caso real:
  `OP11-031` tinha o Activate Main no texto, mas o effects_db so continha o
  On Play.
- `select_grant_can_attack_active_turn` ganhou `allow_played_this_turn` para
  representar "can attack Characters on the turn in which it is played" sem
  transformar isso em Rush completo. O alvo ganha `rush_character_only_this_turn`
  e `can_attack_active_this_turn`, entao pode atacar Character ativo/descansado,
  mas nao Leader.
- `character_can_attack_now`, `active_chars()` e `sim_bridge.can_execute_action`
  passam a aceitar `rush_character_only_this_turn` como permissao temporaria
  para ignorar `just_played`.
- `avaliar_carta()` agora pontua `has_rush_character` /
  `rush_character_only_this_turn`, para o planner valorizar cartas que atacam
  no turno de entrada antes/depois de entrarem em campo.

**Validacao:** `python smoke_fast.py` OK. Novos checks:
- planner reconhece Rush condicional do Nosjuro ainda na mao;
- `OP11-031` recupera o Activate Main ausente do effects_db;
- Jinbe permite Fish-Man recem-baixado atacar Character;
- essa permissao nao gera ataque ilegal ao Leader.

## 2026-07-14 (128) - Codex - turn order ainda sem patch visivel + log Doflamingo

**Log analisado:** `E:\Games\OnePieceSimulador\Builds_Windows\CombatLogs\2026-07-14T00.40.32.log`.
Imu continuou indo primeiro; log salvo no banco via `parse_combat_log.py --add-to-db`.

**Diagnostico:** `LogOutput.log` nao mostrou `turn_order patch`, `turn_order` ou
`escolha de turno`, so mulligan e fluxo de jogo. Portanto o endpoint ainda nao
foi chamado; o problema continua na interceptacao da tela/estado de escolha de
turno, nao na heuristica do engine (que em `smoke_fast.py` retorna Imu segundo).

**Mudanca aplicada:** `Plugin.cs` agora loga `[Bot] Harmony PatchAll executado`
logo apos `_harmony.PatchAll()`. Recompilado OK e DLL copiada para
`E:\Games\OnePieceSimulador\Builds_Windows\BepInEx\plugins\OPTCGBotPlugin.dll`.
No proximo teste, se essa linha nao aparecer, o jogo esta com DLL antiga ou nao
reabriu depois da copia. Se aparecer mas `turn_order patch` nao aparecer, o
patch no metodo privado `WaitOnTurnSelection` nao esta disparando e precisa ser
substituido por hook em outro ponto do start flow.

**Correcao posterior sobre Nosjuro:** a leitura acima estava incompleta.
`OP13-080` ganha Rush com `trash_gte: 7` e so ganha o debuff de poder no
`when_attacking` com `trash_gte: 10`. O bug real era duplo: algumas listas de
atacantes ainda filtravam `just_played` diretamente, e o bridge recusava ataque
recem-baixado olhando `getattr(c, 'rush', False)` em vez de `has_rush` /
`rush_this_turn` / `is_rush()`. Corrigido em `decision_engine.py` e
`sim_bridge.py`; `smoke_fast.py` agora cobre Nosjuro recem-baixado com 7 no
trash e tambem valida que o bridge aceita executar o ataque.
## 2026-07-14 (127) - Codex - turn order ainda nao acionava; patch Harmony em WaitOnTurnSelection

**Log analisado:** `E:\Games\OnePieceSimulador\Builds_Windows\CombatLogs\2026-07-14T00.19.39.log`.
Adicionado ao banco como `Imu-B_x_Jewelry.Bonney-G_2026-07-14T00.19.39`.

**Achado:** Imu continuou indo primeiro. `LogOutput.log` nao tinha nenhuma linha
`turn_order`/`escolha de turno`; o log comecava no mulligan. Portanto o engine
nao escolheu errado: o plugin nao estava pegando a janela de escolha. O polling
em `BotDriver.Update()` e fragil porque `Start_WaitOnTurnSelection` pode passar
antes do primeiro tick do driver.

**Fix feito:** criado `BOT/OPTCGBotPlugin/TurnOrderPatch.cs`, Harmony postfix em
`GameplayLogicScript.WaitOnTurnSelection`. Quando o jogo cria
`Start_WaitOnTurnOrder`, o patch coleta os codigos do deck/mao/lider do bot,
chama `EngineClient.GoFirst(codes)` e clica `GoFirst`/`GoSecond`. `Plugin.cs`
agora cria `Harmony("com.optcgbot.plugin").PatchAll()`.

**Validacao/instalacao:**
- `python smoke_fast.py`: OK.
- `dotnet build BOT\OPTCGBotPlugin\OPTCGBotPlugin.csproj`: OK (warnings antigos).
- `BOT\setup_bepinex.ps1`: DLL copiada para
  `E:\Games\OnePieceSimulador\Builds_Windows\BepInEx\plugins\OPTCGBotPlugin.dll`
  com timestamp `2026-07-14 00:21:58`.
- O jogo estava aberto (`OPTCGSim.exe` rodando), entao a DLL nova so sera usada
  depois de fechar e reabrir o jogo. A copia do `.pdb` falhou por arquivo
  travado; `setup_bepinex.ps1` foi ajustado para avisar e nao falhar quando isso
  acontecer, pois a DLL e o que importa para teste.

**Proximo teste:** fechar e reabrir OPTCGSim. No `LogOutput.log`, procurar
`turn_order patch ... SEGUNDO` e no server log procurar `/turn_order`.
## 2026-07-13 (126) - Codex - pos-log Imu vs Jinbe: Saturn antes do lider + Ground Death sem alvo

**Log analisado:** `E:\Games\OnePieceSimulador\Builds_Windows\CombatLogs\2026-07-13T22.54.47.log`.
Foi adicionado ao banco como `Imu-B_x_Jinbe-G_2026-07-13T22.54.47`
(`logs/raw`, `logs/parsed`, `logs/decks` e `logs/index.json`).

**Achados do log:**
- Imu ficou em 9 DON com `OP13-082` na mao e morreu antes de chegar no turno de
10 DON. O problema principal desta partida foi sobreviver/ordenar as acoes, nao
o custo do Five Elders em si.
- `St. Jaygarcia Saturn` entrou pelo `The Empty Throne`, mas o lider Imu usou
draw/trash antes de atacar com ele e acabou trashando Saturn.
- `Ground Death` foi jogado para negar Camie depois do on-play ja ter resolvido;
como Camie nao tinha texto futuro relevante para aquele turno, o evento gastou
DON sem retorno real.
- Nao houve chamada `/turn_order` no server log desta partida. Como no SoloVSelf
usado aqui P1 e sempre o bot e P1 escolhe a ordem, isso aponta para falha de
fluxo no plugin antes da consulta ao engine.

**Fix feito em `scriptis_da_ia/optcg_engine/decision_engine.py`:**
- `_should_activate_main`: para o lider Imu, efeitos de draw/search com custo
`trash_char_or_hand` agora sao adiados quando ha personagem elegivel ativo que
ainda pode atacar. Isso evita trashar Elder ativo antes de extrair o ataque.
- `_score_play_action` / `_score_activate_main`: `negate_effect` agora pontua
alvos pelo valor futuro do texto negado. Efeito `on_play` ja resolvido nao conta.
Tambem respeita o escopo real do alvo (`opp_character` nao pode ganhar credito
por texto do lider). Ground Death contra Camie pos-on-play cai para score
negativo.

**Validacao:**
- `ast.parse` de `decision_engine.py`: OK.
- `PYTHONDONTWRITEBYTECODE=1 python smoke_fast.py`: OK (~2.6s). Esse e o
pre-flight padrao para teste ao vivo; `smoke_test.py` virou regressao ampla e
nao deve ser usado como smoke curto.
- Teste dirigido: `Ground Death` vs Camie pos-on-play pontuou `-85.0`.
- Teste dirigido: lider Imu com Saturn ativo retorna `False` (`adia ciclo do
lider...`); apos Saturn restado, retorna `True`.

**Correcao adicional apos feedback do usuario:** no SoloVSelf usado aqui, P1 e
sempre o bot e quem escolhe primeiro/segundo. O problema de turno era fluxo do
plugin: `Start_WaitOnTurnOrder` estava depois do cooldown, entao a tela critica
podia passar sem consulta ao engine. `BotDriver.cs` agora ignora cooldown em
`Start_WaitOnTurnOrder` e `Start_WaitOnMulliganChoice`. Plugin recompilado e
instalado via `BOT\setup_bepinex.ps1` em
`E:\Games\OnePieceSimulador\Builds_Windows\BepInEx\plugins`.

**Pendente para teste ao vivo:** repetir Imu vs Jinbe-G. No novo log, confirmar
se aparece `/turn_order` no server log, se Imu escolhe segundo, se Saturn ataca
antes do draw/trash do lider e se Ground Death deixa de ser usado em Camie sem
texto futuro relevante.

## 2026-07-13 (125) - Codex — ajuste win-con Imu/Five Elders no clone correto

**Contexto:** o trabalho foi retomado no root correto
`C:\Projetos_TI\analidador_de_decks_optcg` (não mais no clone antigo do
OneDrive). Foram lidos `CLAUDE.md`, topo do `HANDOFF.md`, `git log -10` e
`git status`.

**Estado encontrado:** já havia log salvo da partida
`Imu-B_x_Kaido-P_2026-07-13T21.01.22` (`logs/raw`, `logs/parsed`,
`logs/decks` + `logs/index.json`) e uma mudança parcial em
`decision_engine.py` adicionando `wincon_ready` na `evaluate_state_v2`.
`sim_bridge.py` já continha a correção relevante do Ground Death/Never
Existed: buff `leader_or_character` em janela defensiva prioriza o defensor
sob ataque, incluindo empate (ataque 5000 vs líder 5000) como situação que
precisa de buff.

**Fix feito:** `_derived_axes_value` agora calcula o progresso da win-con pelo
DON total em campo (`p.don_on_field() / custo`), não por `p.don_available`.
Motivo: no fim da simulação o DON pode estar restado/anexado, mas ele volta
ativo no refresh; usar só DON ativo subvalorizava a linha de sobreviver e
chegar ao turno da bomba de 10 DON (`OP13-082`).

**Validação:**
- Import com `PYTHONDONTWRITEBYTECODE=1`: OK.
- `python smoke_test.py`: OK, todos os testes passaram.
- Teste dirigido: Imu com `OP13-082` na mão, 5 Elders no trash, 8 DON total e
0 DON ativo passou a receber valor maior que o mesmo estado sem DON total.
- Teste dirigido: `OP13-082` em campo + 1 DON ativo + fuel no trash ativou e
trouxe 5 Elders.
- `python smoke_test_broad.py`: imprimiu `40/40 partidas completaram sem exceção`,
mas o runner encerrou por timeout antes do processo sair.

**Observações:** `python -m py_compile` falhou por permissão ao escrever em
`__pycache__`, não por sintaxe; por isso a checagem foi feita via import sem
bytecode. Não mexi nos arquivos não relacionados nem na pasta `.claude/`
untracked.

## 2026-07-13 (124) - Claude — pré-teste-ao-vivo: log de DON do bot + watch-list

Sessão curta de preparo ANTES da validação ao vivo (leva 7 + DTO trash seguem
pendentes de teste em partida real). Foco: tornar o teste caro uma CONFIRMAÇÃO
MEDIDA, não sessão de debug.

**1. FIX (habilitador de medição) — log de DON anexado pelo bot.** Achado
empírico: no último log real (`Imu-B_x_Kid...23.41.50`) as 7 linhas
`Attach N Don` eram TODAS do humano (`[Opponent]`); o DON do bot (`[You]`) nunca
aparecia. Causa raiz no decompilado: o arraste humano chama `LogLine(
"Log.AttachDonMulti", ...)` (GameplayLogicScript.cs:8002/8269); o bot chamava
`AttachDonToCard` direto (BotExecutor `TryAttachDon`) e pulava o LogLine.
Resultado: `don_por_atk` — a métrica MAIS sensível da investigação de
passividade (marco-zero: bot ~0.6 vs opp ~1.2–1.5) — subcontava o bot, tornando
o teste ao vivo cego justamente no que mede. Fix: `TryAttachDon`
(`BOT/OPTCGBotPlugin/BotExecutor.cs`) emite a MESMA linha via reflection do
`LogLine` privado (`_mLogLine`), com `CardName` + count + total. Sai
`[You] Attach N Don to X (Total)`, formato que o `parse_combat_log` (RE_ATTACH)
já lê e atribui ao turno do bot (mesma máquina que já parseava o `[Opponent]`).
**Compilado: 0 erros** (só warnings pré-existentes). Runtime só confirma no jogo.

**2. `scriptis_da_ia/WATCHLIST_TESTE_AO_VIVO.md`** — checklist ÚNICA
consolidando o que estava espalhado (DTO trash bloco 122 + leva 7 blocos
122/123 + fix de DON desta sessão + métricas de passividade).

**3. Pré-flight verde**: smoke_test todos passam, smoke_test_broad 40/40
(`PYTHONHASHSEED=0`).

**4. Limpeza**: `nul` órfão removido; `decision_audit_*.json` + `_debug_prompt_bbox/`
adicionados ao `.gitignore` (saídas efêmeras do auditor, não são o banco de logs).

**PENDÊNCIA IMEDIATA (usuário):** fechar o jogo → `BOT\setup_bepinex.bat` (copia
a DLL nova) → reabrir → jogar seguindo a WATCH-LIST. Confirmar as linhas
`[You] Attach...` no combat log e `don_por_atk` do bot subindo vs ~0.6.
Resto do roadmap (R1 mulligan, item 3 busca prof.2, pipeline self-service)
inalterado — ver bloco 123 e PLANO_AVALIACAO_E_BUSCA.md.

## 2026-07-13 (123) - Claude — SESSÃO GRANDE: núcleo de avaliação + busca (plano mestre)

**LEIA PRIMEIRO:** [scriptis_da_ia/PLANO_AVALIACAO_E_BUSCA.md](scriptis_da_ia/PLANO_AVALIACAO_E_BUSCA.md)
(doc vivo, tem tudo com detalhe) + memória `project_plano_avaliacao_busca.md`.
Mudança de método decidida com o usuário: parar o whack-a-mole de heurística
(pêndulos) e construir UMA função de avaliação global + perfil derivado do deck
+ busca + tunagem por self-play. Itens 0/1/2/5 avançados nesta sessão.

**O QUE FOI ENTREGUE (tudo commitado):**
1. **`evaluate_state_v2` LIGADA (`USE_EVAL_V2=True`) — item 1 CONCLUÍDO.** Régua
   única (vida curva/board/mão/DON/cobertura/tempo + eixos do perfil). Validação
   rigorosa MC=6/n=50, Imu-v2 vs opp-v1: winrate Krieg 0.38→0.40, Kid 0.34→0.36,
   Teach 0.88→0.96, dano e %líder sobem nos 3, SEM regressão. Ponto de drop-in:
   `_simulate_sequence_once` → `_evaluate_state_v2`.
2. **Tunagem (item 5 núcleo): `tune_weights.py`** (coordinate-ascent, self-play
   A=v2 vs B=v1, maximin sem-regressão, MC=4+early-stop). Achou dmg 120→180 e
   counter_hand 6→9 (só 2 pesos, confirmou diagnóstico). Pesos em
   `eval_weights.json` (com camada de confiança `_meta` origin=learned).
3. **Perfil do deck `deck_profile.py` (item 2)** — UNIVERSAL (provado em 7+ decks:
   Imu/Sakazuki/moria/Crocodile todos com reanimação, engines diferentes).
   Deriva arquétipo + eixos (trash-staircase/reanimação-gargalo/inversão/
   disrupção) + PAPÉIS de carta. Alimenta a evaluate_state.
4. **Trilha conhecimento/dados**: `knowledge/crawl_decks.py`+`parse_decks.py`
   baixaram os 103 guias oficiais → **55 decks completos** p/ gauntlet.
   `crosscheck_archetypes.py` = QA (perfil derivado vs rótulo do PDF nos 55).
5. **`card_taxonomy.py` = vocabulário ÚNICO** (arquétipo+disrupção+papéis+
   magnitude+conds) compartilhado por deck_analyzer(front) e deck_profile(motor).
   Acabou a duplicação. NÃO é 2º motor (dado, não decisão).
6. **Gramática R4b (GAP1/GAP3 do crosscheck)**: disruption = denial-only
   (102/102→51/102 decks), remoção genérica desinflada, negate ganha peso de
   controle. NÃO afeta a evaluate_state (que só usa trash/reanim/inversão).
7. **1º/2º ciente do perfil** (`choose_turn_order`), 3 ideias baratas do PDF
   (papéis / camadas de confiança / DecisionTrace), avaliação de 3 repos MTG.

**ESTADO / SALVAGUARDAS:** smoke_test 100%; v2 ligada e validada; front (api.py)
importando; fix de gramática não invalida a v2. Pesos são globais/Imu-tunados
por ora (cache per-deck = pipeline self-service do item 5, a fazer).

**PRÓXIMO (roadmap comprometido, ver PLANO seção "O BOT ENTENDE O DECK"):**
R1 mulligan guiado pelo perfil · R2 sequenciamento de abertura · R3 combos
arbitrários (sinergia genérica; DUAS REGRAS: não individual, não 2º motor;
convergir c/ synergy_states) · R4 enriquecer papéis · R4b resíduo (aggro-por-
estatística p/ híbridos Vivi/Enel/Moria) · item 3 busca c/ resposta do oponente
(quebra o teto do vetor-de-pesos-único) · item 5 full (tunagem per-deck cacheada).
PENDÊNCIA ANTIGA: validar ao vivo a leva 7 (Mars blocker etc.) — reabrir jogo.

## 2026-07-12 (122) - Claude

### DTO com trash + deckCount (prioridade #1 do bloco 121) — IMPLEMENTADO, falta teste ao vivo

O plugin C# agora transmite a lixeira (lista de `CardDto`, info pública) e a
contagem do deck no `PlayerDto`, e `server.py` reconstrói `gs.trash` real e
usa `deckCount` no lugar dos 10 placeholders (fallback 10 mantido pra plugin
antigo). Arquivos: `GameStateDto.cs` (campos `trash`/`deckCount`),
`GameStateBuilder.cs` (lê `Lgo_MyTrash`/`Lgo_MyDeck` — nomes confirmados no
dnspy-export `PlayerState.cs`), `server.py` (`PlayerDto` + `_dto_to_gs`).
Vale pros DOIS jogadores (BuildPlayer/_dto_to_gs são compartilhados).

Validação: `dotnet build` OK (warnings pré-existentes); smoke do
`_dto_to_gs` com trash=11/deckCount=37 reconstruiu certo. **NÃO testado em
partida real** — o efeito esperado ao vivo (condicional, ver memória
`feedback_nao_declarar_resolvido_sem_partida_real`): Ground Death
(OP14-096) counterar com trash>=10, imunidade dos Celestial Dragons
(trash_gte:7) reconhecida, progresso do GamePlan > 0. Requer rodar
`BOT\setup_bepinex.bat` (recompila/copia o plugin) com o jogo fechado e
jogar uma partida com o usuário.

### Segunda leva da mesma sessão: counter por ganho líquido + give_don + 2 achados novos do auditor

Todas as pendências do bloco 121 atacadas (engine puro, sem partida real —
condicional até o próximo teste ao vivo):

1. **Política de counter reescrita por ganho líquido** (`should_use_counter`
   em `decision_engine.py` + `select_counter_cards` em `sim_bridge.py`).
   As duas pontas do bug real eram o mesmo defeito (gates fixos por faixa
   de vida): com 4 vidas, needed=1 passava no gate `<=1000` e gastava
   counter em jab 5000v5000; com vida baixa, needed>2000 estourava o gate
   da faixa e recusava mesmo cobrindo. Agora: countera se o PITCH das
   cartas gastas < valor da vida. Peças novas:
   - `pitch_cost_as_counter`: avaliar_carta MENOS o componente de counter
     (extraído como `_counter_stat_bonus`) — sem isso a decisão era
     circular (counter caro de usar por ser counter). O componente-base
     volta escalado por vida (opção futura: 1.0 com 4+ vidas → 0.1 com 1).
   - `pick_counters`: seleção que MINIMIZA pitch (não counter stat) —
     não pitcha mais Saturn jogável tendo vanilla na mão; usada pelos
     DOIS caminhos (use_counter do simulador e select_counter_cards ao
     vivo, incl. eventos [Counter] no pool).
   - Curva de vida própria na escala do avaliar_carta (12/65/150/250 para
     4+/3/2/1 vidas; vida 0 = sempre countera). `life_redirect_cost` roda
     frio demais nessa escala (corpo custo 5 avalia 100-150).
   Validado com teste dirigido: vida 4 não gasta; vida 2 countera jab
   escolhendo a vanilla e preservando Saturn.
2. **give_don (Kuma)**: branch 'delta' de `order_target_candidates`
   desempatava só por just_played — líder e Shalria 0-poder empatavam e a
   ordem dos candidatos decidia. Agora: alvo restado/recém-jogado por
   último, desempate por MAIOR poder efetivo (líder 5000 > Shalria 0).
3. **Checks G/H no auditor** (via replay_log, eventos 'attack' com snapshot
   antes/depois): G = counter gasto defendendo líder com 4+ vidas; H =
   golpe levado com vida <=2 (ou letal com vida 0) tendo counter que
   cobria. G foi de 5→0 e H de 12→1 (caso restante: precisar 2+ cartas
   por 1 vida, recusa defensável) ao longo da iteração.
4. **Achado novo (spy de trash, 13x/20 partidas): searchers milavam a
   win-con** — take-choice do look_top_deck usava avaliar_carta puro
   (Five Elders ~45 perdia pra qualquer corpo jogável e ia pro trash no
   trash_rest; a cópia milada é irrecuperável — o play_from_trash dela
   filtra power 5000). Fix: take-choice usa `_trash_value` (avaliar_carta
   + proteções de GamePlan/carta cara/counter event).
5. **Sacrifício próprio escolhia a carta MAIS valiosa**: executor de
   ko/trash_character com pool próprio (self_character/all_character)
   usava choose_highest_board_value (correto só pra remoção no oponente).
   Novo `choose_lowest_board_value` (rules_facade) — consistente com a
   régua de _worth_paying_optional_costs.
6. **Falso positivo C/D do auditor**: win-con jogada no turno (combo da
   Five Elders trasha o próprio campo incluindo ela mesma — assinatura
   idêntica a "trashou da mão") flagava C, e a 2ª cópia na mão flagava D.
   Guarda novo: play_card da win-con no turno suprime C/D.

Validação final: smoke_test 100%, smoke_test_broad 40/40, auditor
A/B/C/D/E/F/G zerados, H=1 (defensável). NÃO testado em partida real.

**Auditor agora é determinístico**: partidas motor-vs-motor variavam
entre processos com a MESMA seed (hash randomization de string muda a
ordem de iteração de `set`, e há desempates sensíveis a isso no engine) —
pista de flag evaporava antes de dar pra instrumentar. O
`audit_antipatterns.py` agora se relança com `PYTHONHASHSEED=0`; dois
runs com a mesma seed saem byte a byte idênticos (validado). Flag do
auditor virou caso reprodutível: re-rodar com a mesma seed + spy na
partida acusada. Também é o pré-requisito de comparação limpa antes/
depois pra tunagem de heurística (mesmo conjunto de partidas).

**Pendência restante do bloco 121:** flag D residual em postura LETHAL
(segurando a bomba pra tentar matar) — hoje zerou nos runs, mas não foi
investigada a fundo. E a prioridade #1 (DTO trash/deckCount) segue
aguardando teste ao vivo com o usuário.

### Sétima leva: partida 23:41 (vs Kid) — 6 fixes dos reports detalhados do usuário

Log `Imu-B_x_Eustass.Captain.Kid-Y_2026-07-12T23.41.50` salvo. Confirmado
no log: Never Existed ATIVOU (+4000 de verdade — fix da leva 4 funcionou)
mas mirou errado; counters em vida baixa funcionaram; ponto positivo
reportado pelo usuário (stage→Mars→Shalria→líder mirando Shalria).

1. **Passivas condicionais de keyword nunca ligavam** (causa raiz dupla:
   "Mars não é blocker" + parte da passividade do Nusjuro): _make_card só
   aplica keyword_* incondicional; gain_blocker/gain_rush com trash_gte 7
   (padrão dos Celestial Dragons) não tinham NENHUM caminho de aplicação.
   Novo `apply_conditional_keyword_passives` (grant-only, idempotente —
   trash só cresce) chamado no __init__ do DecisionEngine pros DOIS lados.
2. **Never Existed buffou o Mars parado em vez do líder sob ataque**:
   buff_power era tratado como ('set', 4000) ("poder vira 4000" → preferia
   o alvo mais fraco). Agora é ('delta') e, em janela de defesa, o alvo
   que está LEVANDO o golpe tem prioridade máxima se o buff o salva
   (empate favorece atacante — precisa ficar estritamente acima).
3. **Pêndulo do trash de custo** (leva 6 exagerou): Mars 5000 recém-descido
   via stage foi sacrificado pelo custo do líder/Shalria 2x. A perda do
   campo agora soma custo situacional: recém-entrado +35, blocker (incl.
   condicional) +25, último corpo +40.
4. **Mary Geoise substituiu o Empty Throne DE NOVO** (2º report): o
   desconto por avaliar_carta era raso demais (Empty Throne avalia baixo;
   o bônus de "activate_main recorrente" só existia pra CHARACTER). Nova
   régua `stage_worth` (avaliar cru + 40 se tem activate_main) dos dois
   lados; substituição com ganho <= 0 = -999 (bloqueio duro). E stage
   REDUNDANTE na mão avalia só o upgrade líquido (vira pitch barato —
   resolve também "tinha stage inútil na mão e trashou o Mars").
5. **Counter com mão gorda**: "8 cartas na mão levando dano toda hora" —
   orçamento de vida ganha +8 por carta acima de 5 na mão (vida 4, mão 8:
   12→36 — countera jab pitchando carta fraca; corpo bom continua caro).
6. **1º/2º decidido pelo ENGINE pela curva do deck** (pedido: nada de
   50/50): novo `choose_turn_order` (sim_bridge) + endpoint /turn_order +
   plugin coleta os códigos do deck e clica. Imu (curva 3.8, 9 cartas 7+,
   0 rush) → SEGUNDO. Aggro barato com rush → primeiro.

Validação: 6 cenários dirigidos reproduzindo a partida (todos passam),
smoke 100%, auditor 10 partidas quase zerado (A=1: bot SEGURANDO Mjosgard
jogável — comportamento pedido pelo usuário no item 5, o check A não
distingue reserva de counter), plugin compilado e copiado pro jogo
(23:57:17), server reiniciado com tudo. **Usuário precisa REABRIR O JOGO**
(DLL nova) antes de testar. NÃO testado ao vivo ainda.

### Sexta leva: partidas 23:03/23:09 (vs Krieg) — 3 fixes dos reports do usuário

Logs `Imu-B_x_Krieg-RG_2026-07-12T23.03.36` e `23.09.31` salvos no banco.
O trigger de evento (leva 5) FUNCIONOU ao vivo ("Activate Trigger" no
combat log + `[DEF] trigger OP13-096 -> True` no session log 22.41.02).

1. **Empty Throne no vácuo (3º report!) — CAUSA RAIZ ACHADA**: a regra
   "play_card sem card_type = CHARACTER" existia SÓ no _elegivel_para_play
   (sim_bridge); as outras TRÊS cópias da elegibilidade aceitavam o EVENTO
   "The Five Elders Are at Your Service!!!" (custo 1, 'five elders' nos
   sub_types/nome): `_step_is_viable` (gate), executor de play_card, e a
   varredura própria do `_should_activate_main` (~linha 6835). Com o
   evento na mão o gate dizia "elegível" e a ativação fizzlava no jogo.
   Default CHARACTER aplicado nas 3; reproduzido antes/depois com o estado
   real do turno 3 (gate False agora). LIÇÃO: regra duplicada em N lugares
   = bug sobrevive a N-1 fixes.
2. **Custo do líder Imu nunca trashava a Shalria do campo**: zona
   own_hand (prio 1) sempre vencia own_board (prio 3) no
   order_target_candidates — pagava o draw com Saturn da MÃO todo turno.
   Novo: ator com custo `trash_char*` põe own_board no MESMO tier da mão,
   perda por char_value_score (Shalria 0-poder usada « qualquer carta útil).
3. **Mary Geoise descida POR CIMA do Empty Throne**: jogar STAGE com stage
   própria em campo substitui — `_score_to_play` agora desconta
   avaliar_carta da stage atual (stage nova só compete se vale MAIS).

Validação: repro dos 3 cenários OK, smoke 100%, auditor 10 partidas com
ruído baixo (A=1, H=2 borderline — precisa olhar na próxima sessão:
m04 t11 needed=1 com 1000 na mão recusado). Server reiniciado 23:20 com
tudo. Obs de infra: `Get-ChildItem Length` MENTE pra session log aberto
(NTFS metadata) — o log de 22:41 parecia 0 bytes e tinha 34KB; ler o
conteúdo antes de concluir que não logou.

### Quinta leva: partida 15:27 — PRIMEIRO teste válido (server+plugin novos confirmados) + fix do trigger de evento

Log `Imu-B_x_Marshall.D.Teach-BY_2026-07-12T15.27.45` salvo no banco.
Perícia: server PID 4208 (15:00, código de hoje) + plugin 14:59:50 no jogo
— dessa vez os fixes RODARAM. Resultado mensurável vs baseline da análise:
bot fez 3 de dano (média anterior 1.3, três partidas anteriores 0-2),
counterou certo (Kuma/Shalria 1000, ZERO "for Counter 0"), give_don foi no
LÍDER, nenhum play no vácuo, 7 ataques em 5 turnos (1.4/t vs 0.88). Ainda
perdeu: passividade relativa continua (humano 2.0 atk/t) e o combo Five
Elders não disparou na partida.

Fix novo (reportado pelo usuário): **trigger de EVENTO recusado sempre** —
`resolve_trigger_choice` avaliava `activate_main_effect` com `on_ko_value`
(régua do padrão de PERSONAGEM; evento dá 0 → recusa). "Are At Your
Service" da vida ia pra mão em vez da busca grátis. Agora: EVENTO sem
bloco [Counter] usa o trigger se o main é viável (`_step_is_viable`);
evento COM [Counter] segue indo pra mão. Validado unitário (096→True,
Ground Death→False), smoke 100%, auditor 10 partidas ZERADO (até o H
residual sumiu). Server reiniciado com o código (health 200).

**Discussão estratégica com o usuário (pergunta "hora de ML?")**: ver
resposta na sessão — resumo: 3 camadas de bugs de encanamento (server
velho 2x, plugin descartando counter-event, DTO cego) consumiram os testes
ao vivo; a linhagem de pontuação não está esgotada nem foi de fato testada
com informação completa até 15:27. Próximo degrau proposto: tunagem de
pesos por volume de simulação (auditor determinístico + winrate
motor-vs-motor já permitem A/B limpo) antes de qualquer ML de verdade.

### Quarta leva: teste ao vivo do usuário (2 partidas 14:25/14:30) — INVÁLIDO + 5 fixes achados

**O teste rodou com o SERVIDOR DE ONTEM**: o processo na porta 8765 era o
PID 12932, iniciado 11/07 01:44 — NENHUM fix de hoje (DTO trash, counter
policy etc.) estava ativo. Lição operacional: SEMPRE checar
`Get-NetTCPConnection -LocalPort 8765` + data do processo antes de validar
ao vivo. Reiniciei (novo PID em 15:00, health 200). Os 2 logs foram salvos
no banco (`Imu-B_x_Marshall.D.Teach-BY_2026-07-12T14.25.08` e `14.30.52` —
ATENÇÃO: são a MESMA partida, o autosaved é snapshot parcial do final).

Mesmo assim o log rendeu 5 fixes novos (commitados nesta leva):

1. **Plugin descartava evento [Counter] como counter de stat 0**
   (`BotExecutor.PlayCounters`): "Discard ...Never Existed... for Counter
   0" — 2x na partida, ZERO defesa, bot morreu com counter na mão. Agora
   evento → `HandleMouseClickCardWaitOnCounters` (o handler do clique
   humano, enfileira a ação [Counter] de verdade) SEM clicar ResolveAttack
   no mesmo tick (o step reabre e o /defense reavalia com o buff);
   `_counterEventTried` evita loop se o jogo recusar. Personagem com stat
   continua no DiscardCardForCounter.
2. **select_counter_cards não checava o custo da PRÓPRIA carta do evento**
   (1 DON ativo, o jogo resta ao ativar) — o simulador interno já checava
   (try_counter_event_power); espelhado no caminho ao vivo.
3. **Ground Death jogado no vácuo** (negate_effect com board do opp vazio):
   a penalidade de evento-sem-alvo era hardcoded ko+opp_stage (fix pontual
   do Never Existed, 11/07). Generalizada em `_score_to_play` via
   _step_is_viable/_check_conditions pra QUALQUER evento.
4. **Mjosgard descido com on_play morto** (reanimar Mary Geoise exige
   vida<=3, bot tinha 4): penalidade nova em _score_to_play pra CHARACTER
   cujo on_play não dispara agora (-90 se corpo 0 de poder, -40 senão).
5. **Bot agora decide 1º/2º quando ganha o dado** (`Start_WaitOnTurnOrder`
   não era tratado; 50/50 aleatório de propósito — pedido do usuário pra
   ver a curva par também; escolha estratégica de curva seria lógica de
   deck, não vive no plugin).

Também: `parse_combat_log.py` aceita logs AUTOSAVED (rich-text
`<mark><link=...>` do Unity convertido pro formato final antes dos
patterns).

Validação: smoke 100%, auditor 10 partidas A-G=0 H=1 (defensável), plugin
compila. Plugin PRECISA ser reinstalado: **jogo fechado →
`BOT\setup_bepinex.bat` → abrir jogo** (server novo já está no ar).

### Terceira leva: análise "Imu humano vs Imu bot" (passividade)

A pedido do usuário ("ganho sem levar dano"), comparei as 5 partidas dele
de Imu com as 12 do bot (banco de logs) + 10 motor-vs-motor com o engine
de hoje. Relatório completo com tabela e plano:
`scriptis_da_ia/analise_imu_humano_vs_bot_2026-07-12.md` (+ seção nova no
topo do TODO.md). Conclusão-chave: bot ao vivo 0.88 atk/turno e 42% no
líder vs humano 2.03 e 82% — mas o MOTOR com informação completa faz 91%
no líder; a causa raiz principal era o DTO sem trash (Nusjuro OP13-080,
o beater do deck, tem Rush+imunidade com trash>=7 — ao vivo era avaliado
como vanilla e ia pro descarte). Já corrigido hoje, validação ao vivo
pendente. Detalhe de análise: attach de DON do bot NÃO gera linha no
combat log (reflection pula o log do jogo) — parse subconta agressividade
do bot; os counters baratos do usuário (1000-2000 sempre bastaram) provam
os ataques quase secos.

---

## 2026-07-11 (121) - Claude

### Mudança de método: auditor automático de anti-padrões + 6 fixes achados por ele (sem gastar partida do usuário)

Depois de mais 2 partidas reais com problemas (logs `2026-07-10T23.38.05` e
`2026-07-11T00.49.30`, salvos no banco) e frustração explícita do usuário
com o ciclo "joga → acha bug → fix → joga de novo", mudei o método:
**`scriptis_da_ia/audit_antipatterns.py`** (novo, permanente) roda partidas
motor-contra-motor com os decks reais e acusa turno a turno os anti-padrões
que o usuário apontou ao vivo. Iterar contra ele ANTES de pedir partida real.
Uso: `python audit_antipatterns.py --n 20 [--deck-a Imu --deck-b "Barba Negra BY"] [--detalhes]`.
Checks: A don ocioso c/ jogada disponível; B líder não atacou; C win-con
trashado da mão; D win-con pagável não jogado; E stage não usado c/ alvo;
F líder com draw de activate_main não usado (genéricos — win-con/alvos vêm
do compute_game_plan/card_effects_db, não hardcode). Turnos que TERMINAM a
partida não contam (1ª versão flagava DON "parado" de turno de lethal).

**Fixes achados pelo auditor + pelos 2 logs reais (cada um validado
re-rodando o auditor com o mesmo seed):**

1. **GamePlan fase 2b — bypass do Monte Carlo pro win-con** (flag D, era
   2x/20 jogos): o +600 do fase 2 colocava Five Elders no topo da lista,
   mas a escolha final do main_phase é por simulação MC de fim de turno —
   que NÃO enxerga o valor da reanimação (realiza-se no turno seguinte).
   Linhas "Empty Throne primeiro" (3 DON) venciam e a bomba ficava
   impagável de novo, todo turno. Fix: `main_phase` executa DIRETO a ação
   do topo quando é play do win_con_code com don_available >= don_target e
   priority != LETHAL (o caminho ao vivo já pega o topo direto — bypass só
   alinha o simulador interno). D caiu 2→0 (voltou 3x depois do fix do F
   mudar a forma das partidas — casos restantes são postura LETHAL
   segurando a bomba pra tentar matar, decisão discutível, NÃO investigada
   ainda; próxima sessão pode olhar).
2. **resolve_optional_effect não achava o LÍDER nem checava activate_main**
   (obs. do usuário: "Imu não trashou nenhuma Shalria, tá perdendo draw"):
   busca era só hand+field_chars (líder nunca achado → fallback genérico
   olhando só a mão → mão valiosa = recusa TODO turno), e o loop de
   triggers era só on_play/main (activate_main do líder nunca visto).
   Fix: pool inclui gs.leader e field_stage; loop inclui 'activate_main'.
3. **_worth_paying_optional_costs ignora o campo pro custo
   trash_char_or_hand**: Shalria de 0 poder gasta no campo é sacrifício
   quase grátis (e alimenta o plano de lixeira) — agora se
   min(board_value*10) <= 60 nos personagens elegíveis, paga. (Motor
   compartilhado — vale pros dois caminhos.)
4. **_step_is_viable: ko com target opp_stage olhava field_chars** — Never
   Existed (OP13-098) foi jogado no vácuo com o oponente SEM stage (1 DON +
   carta por nada, log 00.49.30). Agora checa opp.field_stage e cost_lte.
5. **order_target_candidates: prompt de "JOGUE carta da mão" usava régua de
   DESCARTE** (obs. do usuário: "usou o stage à toa"): own_hand rankeava
   por _trash_value (fix #115, correto pra descarte) — num deploy do Empty
   Throne o plugin clicava primeiro na carta mais descartável (evento
   INELEGÍVEL), o jogo recusava e o deploy fizzlava (3 DON + stage por
   nada) mesmo com Ju Peter elegível na mão. Fix: detecção de intenção
   (actor com step play_card source != self) → elegíveis primeiro por
   avaliar_carta desc, inelegíveis por último.
6. **Leader restado não oferecia activate_main** (flag F, 29x/20 jogos →
   0): guarda "fonte restada não ativa" (criada pra personagens com
   rest_self perdido pelo parser) pegava o LÍDER — Imu que atacava antes
   de ativar perdia o draw do turno. Fix: líder sem rest_self nos custos
   pode ativar restado (regra oficial não exige fonte ativa); personagens/
   stages continuam conservadores. TAMBÉM: bônus +30 no _score_activate_main
   pro ciclo trasha→compra quando o deck tem trash_target não batido
   (GamePlan) e a penalidade de early-game não se aplica nesse caso (antes
   o draw do Imu pontuava NEGATIVO em ~25% dos turnos).
7. **server.py: _declined_optional.clear() no /mulligan** — o cache de
   recusas (fix do bloco #120) é chaveado por (código, turno) e vazava
   entre PARTIDAS do mesmo processo.

Validação final: smoke_test 100%, smoke_test_broad 40/40, auditor com
A/C/E/F zerados e D=3 (casos LETHAL, ver item 1).

### Partida de teste 01:36 (log `2026-07-11T01.36.16`, salvo) — 2 fixes a quente + PENDÊNCIAS pra próxima sessão

O usuário testou ao vivo e vários sintomas persistiram. NÃO era arquivo
desatualizado (confirmado: server novo, PID 15064, score 105 do draw só
existe no código de hoje). Causas achadas:

8. **DTO sem deck → viabilidade de 'draw' sempre False AO VIVO**: o
   GameState reconstruído em `_dto_to_gs` tinha `deck=[]` (informação
   oculta) — `_step_is_viable('draw')` exige `len(deck)>0`, então
   `resolve_optional_effect` recusava o draw do líder TODO turno ao vivo,
   enquanto o simulador interno (deck completo) funcionava — POR ISSO o
   auditor dava F=0 e o jogo real falhava. Fix: `_dto_to_gs` preenche
   `gs.deck` com 10 placeholders (deck real nunca está vazio em jogo;
   nada do caminho ao vivo compra do gs.deck de verdade). LIÇÃO GERAL:
   diferença simulador-com-informação-completa vs ao-vivo-com-informação-
   oculta é uma CLASSE de bug que o auditor não pega — checar sempre que
   um comportamento diverge entre auditor e partida real.
9. **Stage ativado sem carta elegível** ("Choose 0 Friendly Targets"):
   `_should_activate_main` não validava steps `play_card` — mão só com
   custo 7+ e eventos, Empty Throne ativava mesmo assim (3 DON + stage
   por nada). Fix: gate novo usando o próprio `_step_is_viable`.

**PENDÊNCIA PRIORIDADE #1 (próxima sessão — decidido com o usuário ao
encerrar, 11/07 ~2h):** o DTO do plugin C# NÃO transmite o TRASH (nem
contagem do deck) — `PlayerDto` só tem hand/board/life/leader/stage/don
(`server.py` ~linha 90; confirmado também em `EngineClient.cs`). Isso é
a MESMA classe do bug #8 (deck vazio): o motor é um só, mas ao vivo ele
recebe um retrato incompleto do jogo. Consequências REAIS já observadas:
`gs.trash = []` ao vivo → (a) o bloco [Counter] do Ground Death
(OP14-096, exige `trash_gte: 10`) NUNCA é usável ao vivo — provável
causa direta da observação do usuário "tinha 2 eventos counter na mão e
não counterou"; (b) a imunidade dos Celestial Dragons (`trash_gte: 7`)
nunca é vista como ativa pelo caminho ao vivo; (c) o progresso do
GamePlan (`len(trash) < trash_target`) fica sempre em 0. Fix certo:
plugin C# enviar a lista do trash (informação PÚBLICA no jogo real — o
oponente vê a lixeira) + contagem do deck no `PlayerDto`
(`EngineClient.cs` captura, `server.py` reconstrói em `_dto_to_gs`,
substituindo os 10 placeholders por contagem real). Exige recompilar o
plugin (`BOT/setup_bepinex.bat`) e testar com o usuário presente.

**Demais pendências (reportadas pelo usuário nesta partida, NÃO
corrigidas):**
- **Kuma anexou o DON restado na Shalria (0 poder) em vez do líder** —
  branch 'delta' (give_don) de `order_target_candidates` desempata só por
  just_played; falta desempate por poder efetivo/utilidade do alvo.
- **Política de counter ruim nas duas pontas** (obs. do usuário): gasta
  counter cedo em jab 5000v5000 com vida 4 (incl. Saturn, personagem
  jogável de custo 4 — `select_counter_cards` ordena só por counter stat,
  sem olhar _trash_value da carta), e depois NÃO countera 3 ataques no
  turno 5 com +2000/+1000/2 eventos na mão. Verificar: Ground Death
  (OP14-096) tem `counter` com `conditions: {trash_gte: 10}` — pode ter
  sido recusa LEGÍTIMA (trash < 10); e a possível causa de não-counter
  dos +1000/+2000: should_use_counter/maior_por_vir. Auditor ainda não
  tem check de defesa — criar check G (counter gasto em ataque barato
  early) e H (ataque letal/valioso não counterado com counter na mão).

### Operacional
Python (`decision_engine.py`, `sim_bridge.py`, `server.py`) + novo
`audit_antipatterns.py`. Logs salvos:
`Imu-B_x_Marshall.D.Teach-BY_2026-07-10T23.38.05`,
`Imu-B_x_Marshall.D.Teach-BY_2026-07-11T00.49.30`.

---

## 2026-07-10 (120) - Claude

### GamePlan fase 2 (prioridade de win-con quando DON bate o alvo) + fix real do loop de ativação recusada

Continuação direta do bloco #119 (GamePlan v1 recém-commitado). Terceira e
quarta partida real do bot jogando Imu no mesmo dia (`2026-07-10T23.19.23.log`
e `2026-07-10T23.38.05.log`, ambos salvos no banco) — usuário reportou que
o turno 4 travava de novo do MESMO jeito que o achado anterior descrevia
("resolve_optional_effect sempre recusando custo só-DON", bloco #119),
mesmo já corrigido.

**1) O fix de ontem resolveu só metade do bug — loop de ativação
recusada.** Cruzando com o log do engine: mesmo com `resolve_optional_effect`
avaliando CORRETAMENTE (podendo legitimamente recusar por falta de alvo,
ex: Empty Throne sem "Five Elders" tipo certo na mão pra jogar de graça),
o `GameState` é reconstruído do ZERO a cada `/decide` — quando a resposta
é `False`, nada no estado muda, e a MESMA ativação de score alto é
reoferecida no próximo `/decide`, travando o turno em loop até o plugin
desistir sem nunca tentar a ação de score mais baixo que sobrava (achado
real: 4 propostas idênticas seguidas, `hand=5 don=4` parado o turno
inteiro). Fix: cache `_declined_optional: set[(codigo, turno)]` em
`server.py`, populado no handler `/defense` fase "optional" quando a
resposta é `False`; `choose_action` (`sim_bridge.py`) ganhou parâmetro
`exclude_activate_codes` que filtra essas ativações do próximo `/decide`
do MESMO turno, deixando o Turn Planner cair pra próxima ação da lista.
Confirmado em log real subsequente: turno trava no máximo 2x (não mais
4x) e progride normalmente até `0 acoes`.

**2) GamePlan fase 2 — prioridade do win-con quando o DON bate o alvo.**
Mesmo com o loop corrigido, o log seguinte (23.38.05) mostrou o problema
de fundo que a fase 1 (bloco #119) não cobria: turno 5, `don=9`
(quase o alvo de 10 do Five Elders), `top3: [(480,'attack'),(480,'attack'),
(470,'attack')]` — TODO o DON vai pra margem de ataque, turno após turno,
e a jogada da bomba nunca chega a competir. Usuário deu o exemplo
concreto: o próprio adversário (jogando Teach) fechou a partida
executando ZEHAHAHAHA (`OP16-116`, rest 8 DON: deploy Teach 093 de graça
+ nega efeito do Imu + ataque letal) — um "plano de jogo" deliberado de
guardar DON pro momento exato do combo, não gastar aos poucos.

Achado técnico importante: DON!! NÃO se perde entre turnos (refresh no
início do turno devolve tudo que foi anexado, + o ramp de +2) — o que
trava a carta-bomba não é "preciso guardar DON ao longo de várias
partidas", é gastar o DON DESTE MESMO turno em margem de ataque ANTES da
bomba competir pela vez, no turno exato em que ela já ficou pagável. Fix
mais simples que "reservar DON com antecedência": quando
`don_available >= plano['don_target']` (calculado por `compute_game_plan`,
já existente da fase 1) e a carta é o `win_con_code`, `_score_play_action`
soma `+600` — supera qualquer ataque normal observado (480-510) mas fica
ABAIXO do bônus de postura LETHAL em ataques (`+500` sobre base já alta,
facilmente 900+) — não deve nunca impedir fechar a partida quando dá pra
matar neste turno. Verificado numericamente: Five Elders com don=9 pontua
98 (não afordável), com don=10 pontua 705 (dispara o bônus).

Validado com `smoke_test.py` 100% e `smoke_test_broad.py` 40/40 sem
exceção após cada fix, isolado.

**Estado emocional do usuário (registrar pra próxima sessão não repetir o
erro de tom):** o dia inteiro foi gasto nesse ciclo comparação→achado→fix→
teste→achado novo, e o usuário expressou frustração explícita ("estamos o
dia inteiro nisso e não estou vendo melhoras, mesmo mandando log de como
se jogar o bot continua tomando péssimas decisões") depois do 3º log
seguido mostrando problema. Isso é justo — cada fix individual foi real e
validado, mas a percepção de progresso pro usuário depende do jogo AO VIVO
melhorar, não só do smoke test passar. Não prometer "resolvido" sem
partida real confirmando.

### Operacional
Python (`decision_engine.py`, `sim_bridge.py`, `server.py`). Logs salvos
no banco: `Imu-B_x_Marshall.D.Teach-BY_2026-07-10T23.19.23`,
`Imu-B_x_Marshall.D.Teach-BY_2026-07-10T23.38.05`.

---

## 2026-07-10 (119) - Claude

### 2 fixes reais (desconto de counter em play, resolve_optional_effect sempre recusando custo só-DON) + decisão de arquitetura: "GamePlan" pré-partida (NÃO IMPLEMENTADO AINDA — ler antes de reabrir isso do zero)

Terceira partida real do bot jogando Imu contra o usuário de Teach
(`2026-07-10T21.41.10.log` e `2026-07-10T22.32.09.log`, ambos salvos no
banco). 2 achados novos, 1 decisão de arquitetura grande registrada aqui
pra não se perder entre sessões.

**1) Desconto de counter em `_score_play_action`.** `avaliar_carta` dá
bônus de valor pra carta com `counter>0` (pensado pra contexto "vale
manter na mão"), mas `_score_play_action` usava esse valor como BASE sem
descontar — ou seja, jogar uma carta com counter alto (Doc Q counter=2000
poder=0, Baby 5 counter=2000) herdava o bônus e pontuava artificialmente
alto pra ir pro campo, esvaziando a mão de counters. Achado real: 2x Doc Q
+ 1x Baby 5 jogados em 2 turnos, bot terminou sem NENHUM counter na mão.
Fix: desconto simétrico do mesmo valor em `_score_play_action` quando
`card.counter>0` (`decision_engine.py`, logo após `base = engine.avaliar_carta(card)`).

**2) `resolve_optional_effect` sempre recusava custo só de `rest_don`.**
A versão anterior (achado de sessão passada) só entrava no bloco de
decisão se o custo tivesse tipo "sacrifício" (`_SACRIFICE_COST_TYPES`) —
custo SÓ `rest_don` (ex: "...Never Existed..." OP13-098, `[Main] You may
rest 1 DON: KO até 1 Stage do oponente custo≤7`) caía no fallback final e
SEMPRE recusava, mesmo com alvo válido e efeito bom. Sem custo real
descontado, o estado não muda quando recusa — a MESMA ativação de score
alto era reoferecida a cada `/decide` seguinte, travando o turno inteiro
em loop (achado via log real: 4 propostas idênticas seguidas, turno
terminou sem jogar a única carta que sobrava na mão, mesmo com 3 DON
livres). `execute()` (simulador interno) chama `_worth_paying_optional_costs`
incondicionalmente pra `on_play`/`main`, sem filtrar por tipo de custo —
o filtro em `resolve_optional_effect` era outra divergência real dos dois
motores. Fix: removido o filtro (`sim_bridge.py`).

Validado com `smoke_test.py` 100% e `smoke_test_broad.py` 40/40 sem
exceção após cada fix, isolado.

**3) Decisão de arquitetura (aprovada pelo usuário, ainda NÃO
implementada nesta sessão — próxima sessão deve continuar daqui, não
redesenhar do zero):** o usuário observou que o bot joga sem noção do
"plano de jogo" do deck — ex: Imu tem o combo Five Elders (custo 10,
reanima até 5 do trash) como bomba, e 5 personagens Celestial Dragons com
`passive: {conditions: {trash_gte: 7}}` (imunidade a remoção). Hoje o
engine só pontua ganho IMEDIATO por turno, sem nenhum alvo de médio prazo
("chegar a 7 no trash", "proteger a bomba até ter 10 DON").

Proposta acordada — um `GamePlan` calculado 1x no início da partida
(varre `card_effects_db.json` do próprio deck, SEM parser novo, os dados
já existem):
- `trash_target`: maior `trash_gte` encontrado em `conditions` de
  qualquer carta do deck (ex: 7 pro Imu). Genérico — funciona pra
  qualquer deck com esse padrão, não hardcode pro Imu.
- `win_con_card`: carta com maior bônus de `play_from_trash`/maior swing
  já identificada pelo scoring existente (`_score_activate_main` já tem
  a lógica de valor de reanimação — reaproveitar, não duplicar).
- `don_target`: custo do `win_con_card`.
- (fase 2, NÃO fazer agora): postura defensiva geral baseada em
  razão de blockers/counters no deck até bater `don_target`.

**Escopo combinado com o usuário pra primeira versão** (não fazer o
`don_target`/postura defensiva ainda): só `trash_target` + proteção do
`win_con_card`. Pontos de plugue já identificados (ainda sem código):
- Custo `trash_char_or_hand` do líder Imu (`_pay_costs`,
  `decision_engine.py` ~linha 2464): bônus pra trashar personagem quando
  `len(self.me.trash) < plan.trash_target`.
- `_trash_value`: proteger `win_con_card` na mão até
  `don_available >= plan.don_target` (parecido com o bônus de carta
  cara custo≥7 que já existe ali, mas ligado explicitamente ao win-con
  identificado, não só ao custo bruto).

Log-mining de partidas humanas foi descartado como fonte PRIMÁRIA (dados
estruturais do `card_effects_db.json` já bastam e generalizam pra
qualquer deck); logs humanos continuam servindo só pra validar/tunar
pesos depois, como já é feito hoje.

### Operacional
Python (`decision_engine.py`, `sim_bridge.py`). Logs salvos no banco:
`Marshall.D.Teach-BY_x_Imu-B_2026-07-10T21.41.10`,
`Imu-B_x_Marshall.D.Teach-BY_2026-07-10T22.32.09`,
`Eustass.Captain.Kid-Y_x_Kuzan-B_2026-07-10T22.05.14` (partida avulsa
não relacionada, salva a pedido do usuário).

---

## 2026-07-10 (118) - Claude

### 3 fixes reais de "agressividade" + conclusão: o gargalo virou balanceamento de deck, não mais bug de decisão

Segundo log real do bot jogando Teach (`2026-07-10T17.00.33.log`, salvo no
banco). Usuário reportou: turno com Laffitte+Fullalead+ataque não completados
(Fullalead na mão duplicado, DON sobrando), Catarina Devon atacando sem
ninguém pra copiar poder, e o padrão recorrente "desce carta barata, carta de
peso fica na mão o jogo inteiro". Investigação levou a 3 fixes confirmados:

**1) `_rest_activates_effect` cego a alvo** — mesma família do achado de
sessões anteriores (viabilidade). Qualquer carta com `[When Attacking]`
"valia atacar mesmo sem chance de passar" (regra de pressão), SEM checar se
o efeito tinha material/alvo. Catarina Devon ("select 1 personagem do
oponente, copie o poder") atacava a 3000 contra um líder de 5000 quando o
oponente não tinha NENHUM personagem em campo — sem chance e sem benefício
nenhum. Fix: novo branch em `_step_is_viable` pra `source: selected_opp_character`
+ `_rest_activates_effect` agora chama `_step_is_viable` de verdade em vez
de confiar só na presença da chave `when_attacking`. Mesmo padrão afeta
Mr.2 Bon Kurei (`EB01-061`).

**2) `don_needed_for_attack` sem `don_livre` no simulador interno — achado
via simulação, não log.** Rodei 60 partidas Teach vs Imu motor-contra-motor
(decks reais, `Barba Negra BY.deck` x `Imu.deck`) pra medir "agressividade"
com número, não impressão: **winrate do Teach = 4/60 (6.7%)**, dano médio
2.67 causado vs 4.88 sofrido. Rastreei uma partida verbose passo a passo:
o líder do Teach anexava DON em excesso numa única declaração de ataque
(ex: 9 DON de uma vez, poder final 14000 quando só ~8000 já garantia
passar) — MUITO além do necessário, sem ganho nenhum (1 ataque = 1 dano de
vida, não importa o excedente), e isso ZERAVA o DON que sobraria pra jogar
Catarina Devon e outras cartas no MESMO turno. Causa raiz: essa conta de
"DON ocioso do plano" (quanto sobra depois das jogadas que o Turn Planner
ainda quer fazer) só existia no caminho AO VIVO (`sim_bridge.don_for_attack`)
— o simulador interno (`_attach_don_for_attack`) chamava
`don_needed_for_attack` sem `don_livre`, tratando TODO don_available como
ocioso. Fix: extraído pra `OPTCGMatch._don_livre_for_plan`, fonte única
usada pelos dois caminhos (eliminou uma duplicação real de "dois motores").
Também removi o teto fixo de 2000 na margem de counter (`opp_counter_potential()`
sem cap) que mascarava parte do sintoma sem resolver a causa.

**3) Achado #3 rebalanceado** (ver bloco anterior) já estava aplicado nesta
rodada de testes.

**Resultado honesto**: os 3 fixes são reais e válidos (cada um confirmado
isoladamente, com teste de integração direto antes de qualquer smoke test),
mas NENHUM moveu o winrate Teach-vs-Imu — ficou em 3-4/60 (~5-7%) em TODAS
as rodadas de teste, antes e depois de cada fix. Rodei um espelho Teach vs
Teach (30 partidas) pra descartar "o motor joga mal o Teach" como causa:
deu quase 50/50 (16-14) com dano parecido dos dois lados (3.9 vs 3.7) —
bem mais alto que qualquer coisa que o Teach conseguiu contra o Imu.
**Conclusão**: o motor pilota o Teach razoavelmente bem contra um
adversário igual; o desempenho ruim contra o Imu especificamente é
desbalanceamento real de deck/matchup (o combo Stage→Five Elders→
reanimação do Imu, turbinado pelos fixes de sessões anteriores, é
simplesmente mais forte que esse Teach nesse confronto), não mais um bug
de decisão do motor. Registrado aqui pra não reabrir essa investigação do
zero numa sessão futura sem essa conclusão.

Validado com `smoke_test.py` 100% e `smoke_test_broad.py` 40/40 sem
exceção após CADA fix, isolado.

### Log persistente do `engine_server` (novo)

`BOT/engine_server/server.py` agora duplica TUDO que passa por `print()`
(aqui e em `sim_bridge.py`, mesmo processo/stdout) pra um arquivo em
`BOT/engine_server/logs/session_<timestamp>.log`, criado sozinho toda vez
que o server sobe — sem precisar depender do usuário deixar o terminal
aberto (scrollback tem limite, janela fecha). Antes, quando o bot parava
de agir no meio de um turno (achado do Fullalead/turno 3 do log anterior),
não tinha como investigar isso só pelo combat log — só o console do
server mostra os `[ENG]`/`[DEF]`/`[PLAY]` de cada chamada de
`/decide`/`/defense`. Pasta `BOT/engine_server/logs/` no `.gitignore`
(diagnóstico efêmero, não é o banco de combat logs).

**Correção no ato de testar** (mesmo bloco, achado ao ligar o server de
verdade): `_TeeStream` não implementava `isatty()` — o uvicorn chama
`sys.stdout.isatty()` ao configurar o log e quebrava a inicialização
inteira (`AttributeError`). Corrigido (`isatty()` repassa pro stream
original + `__getattr__` genérico pra qualquer outro atributo de arquivo
que uvicorn/logging perguntem). Testado ao vivo: server sobe limpo,
`/health` responde.

### Operacional
Python (`decision_engine.py`, `sim_bridge.py`, `server.py`) +
documentação (`BOT/README.md`, `.gitignore`). Log salvo no banco:
`Marshall.D.Teach-BY_x_Imu-B_2026-07-10T17.00.33`.

---

## 2026-07-10 (117) - Claude

### Primeira partida real do bot jogando Teach: 3 achados, o principal explica a "baixa agressividade"

Log `2026-07-10T13.35.57.log` — primeira vez que o bot jogou Teach-BY contra o
usuário jogando Imu-B (papéis invertidos da sessão anterior). Usuário reportou
3 observações; usuário venceu sem sofrer dano.

**1) Baby 5 / Teach-10 turno 6-7 — não era bug.** Conferido: DON disponível
(~4) tornava o Teach-10 (custo 10) literalmente impagável ali; Baby 5 (custo
4) era a única jogada real. O setup anterior (Marshall D. Teach `OP16-119`
colocando Baby 5 no topo da vida, buscando o gatilho "líder multicolor: compre
2") foi jogada correta do bot — só não disparou por variância (vida não foi
revelada em ataque depois).

**2) Trashar Shiryu no redirect do líder — escolha correta, mas achei bug
separado.** `_trash_value` já protegia Black Vortex mais que Shiryu (231 vs
130) entre as opções válidas. Mas nem o parser nem o engine aplicavam o
filtro "**com** [Trigger]" do custo do líder Teach ("trash 1 card with a
[Trigger] from your hand") — tratavam como "trash qualquer carta da mão".
Achado em mais 8 cartas com o mesmo padrão de texto (`OP03-105`, `OP03-115`,
`OP04-105`, `OP08-106`, `OP09-062`, `OP16-117`, `PRB02-017`, `ST29-014`).
Fix em 3 pontos: parser (`gerar_effects_db.py`, tag `has_trigger` no custo),
`_pay_costs` (filtra a mão por `has_trigger` antes de escolher o que
trashar), `resolve_reaction` em `sim_bridge.py` (estimava custo/guard de mão
pequena olhando a mão INTEIRA, não só as cartas elegíveis).

**3) Baixa agressividade (0 dano causado o jogo inteiro) — achado principal,
NÃO era desbalanceamento de peso.** Testei o cenário exato do jogo (ataque
5000 vs 5000 empatado): matar St. Marcus Mars pontuava 180 vs atacar o líder
Imu pontuando só 100. Rastreando a origem do 180, achei a causa raiz: `Card.
has_blocker` (e o mesmo padrão em `has_rush`/`has_double_attack`/`has_banish`/
`has_unblockable`) ficava permanentemente `True` pra qualquer carta cujo
texto contivesse "gains [Blocker]" em QUALQUER LUGAR do texto — inclusive
dentro de uma condição nunca satisfeita. Marcus Mars ("**se** você tem 7+
cartas na lixeira, ... ganha [Blocker]") contava como blocker desde o turno 1
com a lixeira vazia, inflando `score_attack_target` (+60 de bônus
"tem_blocker") pro jogo inteiro, não só quando a condição batia de verdade.

Fix: nova heurística `_leading_keyword()` em `decision_engine.py` —
`parse_card_effects_basic` só marca a keyword como incondicional se ela
aparece entre os tags NO INÍCIO do texto (convenção do jogo: keywords
incondicionais sempre vêm coladas no começo, ex: "[Blocker] (After your
opponent declares...)"). Validado contra 9-11 cartas condicionais conhecidas
(`OP02-050`, `OP11-046`, `OP11-058`, `OP12-063`, `OP15-013`, `OP15-119`,
`OP16-005`, `PRB02-014`, `ST23-001`, `OP13-091`, `OP06-010` — todas
corretamente NÃO detectadas como incondicionais) e uma amostra de blockers
de verdade (todas corretamente detectadas). **Cuidado**: NÃO aplicar essa
heurística a `has_trigger` — `[Trigger]` segue convenção OPOSTA (sempre no
FINAL do texto); confirmado numericamente antes de aplicar (só 42/475 cartas
com `[Trigger]` teriam o tag "no início" — quase todas quebrariam).

Com o fix isolado, o mesmo cenário de teste virou 75×100 (líder vence sozinho)
— **não foi necessário tocar no peso de `score_attack_target`**. Recomendado
testar de novo só com esse fix antes de considerar qualquer ajuste de peso,
pra isolar causa e efeito.

Validado com `smoke_test.py` 100% e `smoke_test_broad.py` 40/40 sem exceção
após CADA fix (isolado), mais um teste de integração direto reproduzindo o
cenário exato do jogo (antes/depois do fix).

### Operacional
Python (`decision_engine.py`, `sim_bridge.py`) + parser (`gerar_effects_db.py`,
`card_effects_db.json`, `parser_snapshot.json` via `gerar_dbs.py` +
`snapshot_parser.py`). Log salvo no banco:
`Marshall.D.Teach-BY_x_Imu-B_2026-07-10T13.35.57`.

---

## 2026-07-10 (116) - Claude

### Prep pro teste do bot jogando Teach: parser de OP09-093 + implementação completa de `negate_effect`

Usuário pediu pra analisar os 7 logs onde ele jogou de Teach (lado `[Opponent]`
dos jogos Imu-bot desta sessão) e ir atrás dos padrões de jogo antes de testar
o bot jogando Teach pela primeira vez. Redirect, empilhar counters e o
investimento pesado (ZEHAHAHAHA) já estavam cobertos — sem mudança. Achado
novo: `OP09-093` (Marshall D. Teach personagem, aparece nas 7 partidas) tinha
duas lacunas.

**1) Parser perdia 2 das 3 partes do texto**: `[Activate: Main]` do
OP09-093 é "nega o efeito do líder oponente. Depois, nega o efeito de 1
personagem E trava o ataque dele até o fim do próximo turno do oponente" —
`parse_negate_effect` (`gerar_effects_db.py`) só capturava a cláusula do
personagem (via `re.search`, que só acha a 1ª ocorrência, e o padrão
genérico não reconhecia "...opponent's Leader" sozinho, só "leader or
character"). Fix: novo padrão composto que detecta as DUAS cláusulas
("Leader... Then... Character... cannot attack") e emite os 3 steps
corretos. Cuidado: a 1ª versão do fix capturava demais — confundia com o
idioma "Leader or Character cards" (escolha de UM alvo) usado em 3 outras
cartas (`OP09-097`, `OP09-098`, `OP16-115`), duplicando a cláusula.
Corrigido com negative lookahead `(?!\s*or\s*character)`. `diff_parser.py`
confirmou PERDEU=0 e só o OP09-093 mudou de conteúdo.

**2) `negate_effect` não tinha handler de execução nem categoria de score**
— a action já aparecia em 4 cartas parseadas mas era no-op silencioso
(mesmo padrão do achado do `play_from_trash`/Five Elders, blocos
anteriores). Implementado ponta a ponta:
- Campo novo `effects_negated_until: str` no `Card` (mesmo padrão de
  `cannot_attack_until`), resetado no `refresh_phase` do dono e incluído
  no `__deepcopy__` customizado (campo faltando aqui = perdido em todo
  clone do Turn Planner, silenciosamente).
- Gate no topo de `EffectExecutor.execute()`: carta negada não dispara
  NENHUM trigger futuro (não desfaz on_play já resolvido).
- Handler em `_execute_step` pra `negate_effect` (targets: `opp_leader`,
  `opp_character`, `opp_leader_or_character` — escolhe entre líder/melhor
  personagem por `board_value()`).
- Viabilidade em `_step_is_viable` (líder sempre viável; personagem precisa
  de alvo elegível).
- Categoria própria em `_score_activate_main` (bucket de remoção/controle,
  base=100 — antes caía no fallback genérico de 60). Também adicionei
  `lock_opp_character_attack` nesse bucket (mesma lacuna, mesma carta).

Validado com teste de integração direto (OP09-093 nega o líder Imu +
nega/trava um personagem; confirmado que o líder Imu negado não consegue
mais usar a própria habilidade depois) e `smoke_test.py`/`smoke_test_broad.py`
(100% / 40-40) rodados após CADA mudança (parser e engine, separadamente).

### Operacional
Parser (`gerar_effects_db.py`, `card_effects_db.json`,
`card_analysis_db.json`, `parser_snapshot.json` via `gerar_dbs.py` +
`snapshot_parser.py`) + engine (`decision_engine.py`). Nenhum log novo
salvo neste bloco.

---

## 2026-07-09 (115) - Claude

### Comparação humano-vs-bot jogando Imu revela por que o bot quase nunca monta o combo Stage→Five Elders→reanimação

Usuário pediu pra comparar TODOS os logs em que ele jogou de Imu (2 no banco,
`Nami-BY_x_Imu-B_2026-07-01` e `Imu-B_x_Monkey.D.Luffy-BP_2026-07-01`, ~17
turnos cada) contra os 7 logs desta sessão do bot jogando Imu. Matchups
diferentes (Teach vs Nami/Luffy), mas dá pra comparar tendência estrutural.

**Diferença gritante**: o usuário NUNCA trashou Five Elders (`OP13-082`,
custo 10, a carta-motor do combo "reanima até 5 personagens do trash") em
nenhuma das 2 partidas — o bot trashou em 4 das 7 (3 delas era a ÚNICA cópia
na mão, não uma duplicata descartável). O usuário jogou Five Elders de graça
via Empty Throne 3-4x POR PARTIDA (quase todo turno, montando um exército
reanimado); o bot só em 2 de 7 partidas, e a reanimação em si só disparou
UMA vez em todas as 7.

**Causa raiz**: `order_target_candidates` (`sim_bridge.py`) resolve qualquer
prompt AO VIVO de "selecione 1 carta pra descartar" (a tela real do jogo,
tipo a do print que o usuário mandou). A zona `own_hand` usava
`engine.avaliar_carta(card)` (heurística fraca — acha caro/injogável AGORA
= ruim) — EXCETO no caso especial de redirect do líder Teach (achado
07/07), que já usava `EffectExecutor._trash_value(card)` (heurística rica,
protege carta de custo≥7 mesmo sem DON pra jogar agora). O caso GERAL
(custo do próprio líder Imu, "trash 1 da mão" da Saint Shalria, etc) ainda
caía na versão fraca. `avaliar_carta(Five Elders)=45` vs
`avaliar_carta(Saturn)=115` — o motor escolhia sacrificar a peça mais
valiosa do deck pra comprar 1 carta genérica, logo no turno 1.

**Fix**: zona `own_hand` agora usa `_trash_value` SEMPRE, não só no caso do
redirect — mesma régua pra qualquer prompt de descarte. Testado
reproduzindo a mão exata de um log real (Five Elders + 2x Ju Peter + Saturn
+ Never Existed): antes do fix a ordem colocava Five Elders primeiro
(descarte); depois, Saturn vai primeiro e Five Elders fica protegido —
igual ao que o usuário sempre fez. `smoke_test.py` 100%,
`smoke_test_broad.py` 40/40 sem exceção.

### Operacional
Só Python (`sim_bridge.py`). Nenhum log novo salvo neste bloco (comparação
usou logs já existentes no banco).

---

## 2026-07-09 (114) - Claude

### Achado de "dois motores" real (não só suspeita) + gate mecânico novo pra pegar isso automaticamente

A partir do log `19.25.50.log` (Imu vs Teach, salvo no banco), 3 novas observações do
usuário levaram a mais 2 achados e uma pergunta de fundo importante.

**1) Guarda do custo `trash_char_or_hand` protegia personagem "morto"**: no custo do
líder Imu (trashar 1 Celestial Dragon do campo OU 1 carta da mão), uma guarda evitava
trashar qualquer personagem "ativo" (não restado/just_played), forçando trash da mão
em vez dele — mas não checava se esse personagem tinha ALGUM motivo real pra continuar
ativo. Saint Shalria (0 de poder, efeito só no On Play, já gasto) era protegida do
mesmo jeito que um atacante de verdade, custando carta da mão à toa. Fix: a guarda só
protege personagens com poder > 0 (`decision_engine.py`, `_pay_costs`).

**2) "Dois motores" de verdade (não suspeita — achado confirmado)**: rastreei o caso
do usuário "Marcus Mars jogado sem alvo pro K.O., mas custou 1 carta da mão mesmo
assim" até `resolve_optional_effect` em `sim_bridge.py` — o caminho AO VIVO ("you may
trash 1: K.O...") tinha sua PRÓPRIA régua (`avaliar_carta(pior) <= 60`), completamente
separada da que o simulador interno usa (`EffectExecutor.execute()`, que só paga custo
se `_step_is_viable` confirma que o benefício tem alvo). Pior: o caminho ao vivo nem
sabia qual carta estava perguntando (sem `actorCode`), então não tinha como checar
viabilidade nem que quisesse. Reproduzi exatamente o caso (Shiryu custo 6 em campo,
Mars pede alvo custo≤5): confirmado que o custo era pago sem alvo válido.

**O usuário apontou a causa raiz certa**: isso é a violação exata que a regra "sem
dois motores" existe pra evitar ([[feedback_dois_motores]]). Fix de verdade (não só
band-aid): extraí a decisão "vale pagar esse custo opcional?" pra um ÚNICO método,
`EffectExecutor._worth_paying_optional_costs` (`decision_engine.py`) — chamado tanto
por `execute()` (simulador interno, antes de `_pay_costs`, só pra triggers on_play/main)
quanto por `resolve_optional_effect()` (sim_bridge.py, caminho ao vivo, que agora é só
um wrapper fino sem heurística própria). C# (`BotDriver.cs`) passa a mandar o
`actorCode` (`BotExecutor.ActorCode`, já existia pra outro uso) pra fase
"optional"/"reaction" do `/defense`, resolvendo o "não sabia qual carta perguntou".
Validado: os dois caminhos concordam exatamente no mesmo cenário de teste (nenhum dos
dois paga sem alvo). `smoke_test.py` 100%, `smoke_test_broad.py` 40/40 sem exceção.

**3) Pergunta de fundo do usuário**: "estamos balanceando só o Imu ou melhorando o
motor?" — resposta honesta: o código é genérico (nenhum fix tem `if code ==`), mas
testamos só com Imu vs Teach, então todo bug novo aparece "vestido" de Imu. O caso
Mjosgard (deploy de um vanilla 0-poder quando valia mais como counter de 2000 na mão)
é provavelmente mais um sintoma do achado #3 já conhecido (`avaliar_carta` favorecendo
custo baixo, ainda pendente — ver blocos anteriores). Ainda não atacado diretamente.

### Gate mecânico novo: `scripts/hooks/pre-commit` agora BLOQUEIA, não só lembra

O hook antigo só imprimia as regras de memória (lembrete passivo — não impediu o achado
#2 acima, que só foi pego porque o usuário notou jogando, não porque a IA releu o
lembrete e conectou os pontos). Adicionei um gate mecânico: se o diff staged de
`sim_bridge.py`/`server.py` adiciona, num mesmo HUNK do diff, uma comparação numérica
literal (`<= 60`, `== 5`, etc — assinatura de limiar de decisão) SEM nenhuma chamada
visível a um ponto de entrada conhecido do engine (`DecisionEngine`, `EffectExecutor`,
`avaliar_carta`, etc — lista mantida no topo do hook), bloqueia o commit com instruções
claras (delegar pro engine, ou `--no-verify` se for falso positivo confirmado).
Checagem é por HUNK (`git diff -U0`), não por arquivo inteiro — testei e confirmei que
checar "o arquivo inteiro toca o engine em algum lugar" sempre passa (todo arquivo do
bridge importa `DecisionEngine` por definição), então não pegava nada na prática.
Testado nos dois sentidos: uma função fake reimplementando uma régua própria foi
bloqueada; o diff real desta sessão (que delega corretamente) passou limpo.
Reinstalar em cada clone/máquina: `sh scripts/setup-git-hooks.sh` (já cobre o
pre-commit novo, não só o pre-push).

### Operacional
Python (`decision_engine.py`, `sim_bridge.py`) + C# (`BotDriver.cs`, recompilado) +
hook novo (`scripts/hooks/pre-commit`, precisa reinstalar via setup-git-hooks.sh nas
outras máquinas/clones). Log salvo no banco:
`Imu-B_x_Marshall.D.Teach-BY_2026-07-09T19.25.50`.

---

## 2026-07-09 (113) - Claude

### 4 achados estruturais em sequência, a partir de 3 logs reais novos (16.39/17.52/18.39 — todos salvos no banco, Imu vs Teach)

Usuário continuou testando ao vivo enquanto eu investigava em paralelo.
Cada observação virou um achado genérico (custo duplicado, viés de
recursão de deck, gate de defesa sem noção de valor, custo fantasma),
não um patch pontual — seguindo a mesma diretriz de sessões anteriores.

**1) Mão cheia + DON parado + líder do Imu sem ciclar carta**
(`_score_activate_main`, `decision_engine.py`): a habilidade do líder
(trashar 1 da mão/campo → comprar 1) era penalizada DUAS VEZES pelo
mesmo custo — uma vez pelo cap `min(base, 45)` (efeito não é vantagem
líquida de carta) e de novo subtraindo `perda*0.3` da carta trashada.
Empilhados, o score ia facilmente pra negativo mesmo sem nada melhor
pra fazer, e o loop do turno (`main_phase`) para assim que a MELHOR ação
disponível é negativa — terminando o turno com mão cheia e DON parado.
Fix: pula a subtração de `perda` quando é um ciclo card-neutro
(`draw_count <= trash_count`), já que o cap já precifica esse trade-off.

**2) Bot trashando evento `[Counter]` em vez de personagem reanimável**
(`_trash_value`, `EffectExecutor`): ao escolher qual carta trashar pro
custo da habilidade do líder, o motor não tinha noção de que o Five
Elders (`OP13-082`) em campo reanima cópias de 5000 de poder do próprio
trash — protegia eventos counter (bônus fixo) e ignorava que perder um
Elder de 5000 é temporário. Fix genérico: qualquer personagem na mão que
bata o filtro de um `play_from_trash` disponível (campo ou mão, condições
checadas) tem o valor de trash descontado em 60% — a própria carta de 10
custo (que não bate `power_eq=5000`) continua protegida. Também suavizei
a proteção de eventos `[Counter]` com retorno decrescente conforme a
quantidade já na mão (1 counter protege forte, 3+ protege pouco).

**3) Bot gastou 2 eventos counter pra salvar 1 personagem de baixo valor**
(`should_use_counter`/`select_counter_cards`): o gate de "vale counterizar"
usava a MESMA lógica de vida do jogador tanto pra defender o líder quanto
pra defender um personagem qualquer — sem comparar o valor do personagem
defendido com o valor gasto. Fix: quando o alvo do ataque é um
personagem (via `defender_uid`), a decisão passa a comparar
`char_value_score(defendido)` vs soma de `avaliar_carta` das cartas de
counter gastas — só counteriza se compensar. **Achado no caminho**: o
C# (`BotDriver.cs`) nunca mandava o `defenderId` pra fase "counter" do
`/defense` (só pra "reaction"/"optional") — sem isso o fix em Python não
teria efeito nenhum ao vivo. Corrigido e recompilado (build OK).

**4) Líder quase não ataca mesmo com DON parado sem outro uso possível**
(`_activate_main_value`): essa função desconta o score de QUALQUER ataque
(líder ou personagem) assumindo que atacar sempre custa a chance de usar
o `[Activate: Main]` no mesmo turno — verdade só quando a habilidade
exige a carta ATIVA (custo `rest_self`). A habilidade do líder Imu não
tem `rest_self` (atacar e comprar carta são independentes), mas o
desconto de -70 era aplicado do mesmo jeito, e somado ao desconto de
risco de trigger derrubava o ataque do líder pra negativo — o turno
terminava sem atacar e com DON sem nenhum outro uso possível. Fix:
só desconta quando a habilidade tem custo `rest_self` de fato. Testado
isolado: cenário antes tinha 0 ações candidatas (só a inválida, negativa);
depois, atacar com o líder pontua +72.4 e é escolhido.

**Ressalva do usuário (registrar para não regredir)**: passar o turno com
DON ativo/parado É válido quando esse DON está reservado pra usar uma
habilidade ou counter no turno do OPONENTE (`_don_reserve_for_defense`
já existe pra isso) — o problema era especificamente DON sem NENHUM uso
possível, nem agora nem reservado pra depois.

Validado: `smoke_test.py` 100% e `smoke_test_broad.py` (40/40 sem
exceção) rodados após CADA um dos 4 fixes, isolado.

### Operacional
Python (`decision_engine.py`, `sim_bridge.py`) + C# (`BotDriver.cs`,
já recompilado). Logs salvos no banco:
`Imu-B_x_Marshall.D.Teach-BY_2026-07-09T{17.52.14,18.39.46}` (o de
17.42.21 já tinha sido salvo antes da investigação começar).

---

## 2026-07-09 (112) - Claude

### Achado ESTRUTURAL importante: `_score_activate_main` tem taxonomia FIXA de "tipos de efeito bons" — qualquer ação fora da lista cai num fallback de 60 pontos, subestimando efeitos poderosos

Usuário reportou (3ª partida, `2026-07-09T17.22.22.log`, salva no banco):
bot ficou sem mão de novo, "quase não usou" o Stage, jogou Five Elders
(`OP13-082`, custo 10 — o personagem do combo "trash seu campo inteiro,
reanima até 5 diferentes Five Elders da lixeira") e nunca ativou o efeito
dele. **E fez uma observação crítica**: isso é o MESMO tipo de problema
já visto antes com Teach não usando o Stage — "estamos resolvendo
situações pontuais de cada líder e jogada, precisamos fazer o bot pensar
melhor". Levei isso a sério em vez de investigar só a carta reportada.

**Achado**: `_score_activate_main` (`decision_engine.py`, `OPTCGMatch`)
pontua a ação de ativar um Activate:Main por uma lista FIXA de categorias
reconhecidas — `draw/busca=170`, `play_card=110+`, `remoção/controle=100`,
`don-ramp=90`, **e qualquer ação que não bate com nenhuma delas cai no
`else: base = 60`**, a MESMA pontuação genérica de qualquer efeito
irrelevante. Empty Throne usa `play_card` (categoria reconhecida — por
isso FUNCIONA, o "quase não usou" foi só o ramp natural de DON até ter
7 disponível, não bug). Five Elders usa `trash_character` +
`play_from_trash` — **nenhuma das duas está na lista** — caía no
fallback de 60, e ainda levava a penalidade de custo (`trash_from_hand`,
`rest_don`), ficando com score baixo/negativo, sempre perdendo pra
qualquer outra ação (inclusive "não fazer nada"). Confirmado: **8 cartas
diferentes no banco inteiro** têm `play_from_trash` no Activate:Main
(`Blueno, Lily Carnation, Thriller Bark, Kuzan, Coribou, Five Elders,
Kouzuki Momonosuke, Yamato`) — todas sofriam da mesma subestimação, não
só o Five Elders.

**Fix genérico**: nova categoria reconhecida `play_from_trash` em
`_score_activate_main` — soma o valor real dos alvos elegíveis na
lixeira (respeitando `filter_type`/`distinct_names`/`count` do step,
mesma lógica que `play_card` já usa pra mão) em vez de um número fixo.
Quando o custo inclui "trash TODOS os seus personagens" (`trash_character`
com `count>=99`), desconta o valor do board atual sendo sacrificado —
senão a IA acharia que ganhou os reanimados de graça em vez de ter
TROCADO o campo. Validado: cenário da partida real (board quase vazio,
lixeira cheia de alvos, vida crítica) score subiu de ~45 pra **175**
(compete de verdade com outras ações); cenário sem alvos na lixeira
mantém score baixo/negativo (-55, não força ativação sem motivo).
`smoke_test.py` 100%, `smoke_test_broad.py` rodando.

**Sobre "ficou sem mão de novo"**: não investigado a fundo nesta rodada —
é provavelmente o mesmo achado #3 de ontem (`avaliar_carta` favorecendo
custo baixo), ainda pendente de rebalanceamento dedicado. Não é um bug
novo, é o mesmo already-flagged issue se manifestando de novo.

### Reflexão sobre o padrão do dia (registrado, não é ação)
O usuário tem razão que hoje foram VÁRIOS achados parecendo pontuais
(Sanjuan Wolf, Kuma, Teach OP09-093, contadores de evento, busca do Imu,
agora Five Elders) — mas cada um foi corrigido generalizando a CAUSA
RAIZ (contexto de ataque vazando, viés de DON em escolhas sem custo,
taxonomia incompleta de categorias de efeito), não a carta específica,
e cada fix comprovadamente afeta múltiplas cartas do banco (confirmado
numericamente em quase todos). Ainda assim, o padrão de "descobrir uma
categoria inteira faltando toda vez que uma carta nova aparece" sugere
que a arquitetura de scoring (`avaliar_carta`/`_score_activate_main`/
`_score_play_action`) tem mais buracos de taxonomia por aí — vale
considerar, numa sessão futura, uma auditoria preventiva de TODAS as
`action` que aparecem em `card_effects_db.json` vs. quais são
reconhecidas por essas 3 funções de score, em vez de esperar a próxima
partida real expor a próxima categoria faltando.

### Operacional
Só Python (`decision_engine.py`). Server reiniciado. Logs salvos no
banco (`Imu-B_x_Marshall.D.Teach-BY_2026-07-09T17.22.22`).

---

## 2026-07-09 (111) - Claude

### 3 fixes reais no motor: counters de evento, gate de "vale counterizar", viés de custo em buscas grátis

Usuário reportou 2 observações jogando de Teach contra o bot de Imu, que
viraram 3 fixes (a terceira era a mesma causa em dois pontos):

**(a) Counters de EVENTO nunca eram usados na defesa ao vivo.**
`select_counter_cards` (`sim_bridge.py`, usada de verdade pelo
`/defense counter`) só somava o stat impresso de Counter em personagens
(`c.counter > 0`) — nunca considerava eventos com bloco `[Counter]` no
texto (ex: `OP13-098` "...Never Existed...", Imu: "+4000 power during
this battle"). O motor JÁ TINHA toda a lógica de avaliação desses eventos
(`EffectExecutor.try_counter_event_power`/`_check_conditions`/
`_counter_event_cost_payable`), só nunca era chamada nesse caminho ao
vivo — só pelo simulador interno. Fix: `select_counter_cards` agora monta
um pool combinado (personagens + eventos elegíveis, em modo SÓ LEITURA,
sem mutar estado — a mutação real acontece no jogo quando o C# descarta a
carta) e ordena tudo pela mesma régua.

**(b) O GATE que decide "vale a pena counterizar" também só via o stat
impresso.** `should_use_counter` (que `select_counter_cards` chama ANTES
de sequer montar a lista) usava `self.me.counter_in_hand()` — mesma
lacuna, sem awareness de eventos. Corrigido: `should_use_counter` ganhou
parâmetro opcional `counter_avail` (default preserva comportamento
antigo pra todo resto do código); `select_counter_cards` monta o pool
combinado PRIMEIRO e passa o total real pro gate.

**(c) Viés de custo/DON aplicado em escolhas SEM custo — achado maior,
generaliza pra qualquer efeito de busca no jogo, não só o Imu.** Usuário
relatou que o bot escolhe sempre Mary Geoise (custo 1) em vez de Empty
Throne (custo 7) na busca gratuita de stage do líder Imu ("at the start
of the game, play up to 1 [Mary Geoise] type Stage card from your deck"
— achado extra: o parser nunca capturou essa ability específica do Imu,
mas não precisou consertar isso — ver abaixo). Causa: `order_target_
candidates`, zona `top_deck`, ordena por `avaliar_carta()` — que pesa
"dá pra pagar AGORA" (+40/+20/-15 conforme DON disponível). Numa busca
GRÁTIS (sem custo, comparando 2 opções que já estão technically "de
graça"), esse peso não faz sentido nenhum — e com 0 DON em campo no
início do jogo, SEMPRE favorece a carta mais barata, não a melhor. Fix:
`engine_busca` — clone raso de `DecisionEngine` com `don_available`
artificialmente alto (99), usado só pra zona `top_deck`, zera o
bônus/penalidade de jogabilidade sem perder o resto do sinal de
`avaliar_carta` (poder, keywords, on-KO etc). Validado numericamente:
Mary Geoise 20→40 vs Empty Throne 0→55 (don=0 vs don=99) — a ordem
inverte corretamente. **Não precisou tocar no parser do Imu**: a zona
`top_deck` já cobre a busca dele igual cobre qualquer outro efeito de
busca do jogo — o fix é genérico por construção, não por-carta.

Validado: testes diretos dos 3 cenários (evento cobre ataque / evento não
cobre / condição do evento falha; Mary Geoise vs Empty Throne com DON
neutro) todos bateram com o esperado. `smoke_test.py` 100%,
`smoke_test_broad.py` rodando (aguardando confirmação).

### Pendência (não bloqueante)
Parser ainda não captura a ability única do Imu ("at the start of the
game, play up to 1 [X] type card from your deck") — não é usada por
nenhuma OUTRA carta no banco hoje (`grep` confirmou), então baixa
prioridade; registrado só pra completude futura caso o simulador interno
(`OPTCGMatch`) precise dela algum dia (o fix de hoje resolve o caminho AO
VIVO sem precisar dela).

### Operacional
Só Python (`sim_bridge.py`, `decision_engine.py`, `server.py`) — sem
mudança de C#/DLL, sem `gerar_dbs`. Server reiniciado com os 3 fixes.

---

## 2026-07-09 (110) - Claude

### Banco de logs: obrigação nova no CLAUDE.md + 2 bugs pré-existentes corrigidos na ferramenta

Usuário perguntou se eu estava salvando os combat logs que ele manda — não
estava (só existiam na conversa; o update do simulador do bloco 109 apagou
os originais). Ele revelou que **já existe um banco de logs de verdade**
(`scriptis_da_ia/logs/{raw,parsed,decks}/` + `index.json`, ferramenta
`parse_combat_log.py --add-to-db`, documentado em `TODO.md` seção
`📊 BANCO DE LOGS`) — eu não sabia e tinha criado `BOT/test_logs/` por
conta própria no bloco anterior (desfeito agora, `rm -rf`).

**Obrigação nova escrita no `CLAUDE.md`** (seção "Banco de logs de
partidas reais — OBRIGATÓRIO salvar"): toda vez que o usuário mandar um
combat log, a sessão (Claude ou Codex) tem que rodar
`python parse_combat_log.py <log> --add-to-db` antes de considerar a
tarefa terminada. Vale pra Codex também — `CLAUDE.md` é lido por qualquer
sessão nova, é o lugar certo pra regras assim.

**2 bugs pré-existentes achados e corrigidos ao tentar usar a ferramenta
pela primeira vez** (`parse_combat_log.py`): `index.json` tem 2 schemas
diferentes (10 entradas antigas do lote "autosaved_log" usam
`original_file`/`total_turns`, sem `id`/`date`/`turns`; as demais 30+ usam
o schema novo com `id`/`date`/`turns`). `add_to_db()` e `list_db()`
assumiam TODAS as entradas tinham o schema novo (`e['id']`, `e['date']`,
`e['turns']`) — `KeyError` em ambas ao rodar contra o banco real. Fix:
`.get()` com fallback (`e.get('id')`, `e.get('date') or
e.get('original_file','')[:10]`, `e.get('turns', e.get('total_turns'))`)
nos dois lugares. Validado: `--add-to-db` das 2 partidas do bloco 109
funcionou (`Imu-B_x_Marshall.D.Teach-BY_2026-07-09T16.07.36` e `...16.12.30`,
42 entradas no índice agora), `--list-db` lista as 42 sem quebrar,
`smoke_test.py` 100% (não testa esse arquivo diretamente, mas confirma
nada mais quebrou).

### Operacional
Nada de C#/DLL nesta rodada — só Python (`parse_combat_log.py`) +
`CLAUDE.md`. Server não precisa reiniciar. Considerar se `BOT/vendor/`
(zip do BepInEx, ~622KB) deve ir pro git ou pro `.gitignore` — ainda não
decidido.

---

## 2026-07-09 (109) - Claude

### Sessão nova: bot jogando de IMU (usuário jogando de Teach) — reinstalação do BepInEx + 2 fixes reais

**Contexto novo**: usuário propôs inverter os papéis pra testar generalização —
ele joga de Teach, o bot joga de Imu (carrega os decks trocados nos slots do
SoloVSelf; o bot so controla `Lps_Players[0]`, é agnóstico de qual deck tá lá).

**0. Simulador atualizou e apagou a pasta BepInEx inteira** (reinstall/update
do jogo às 15:44 de hoje zerou `E:\Games\...\Builds_Windows\BepInEx\`).
Sem backup local do instalador. Baixei a versão oficial certa (BepInEx
5.4.23.2, Windows x64 — confirmada pela versão que já aparecia no
`LogOutput.log` antigo) do GitHub oficial, salvei em `BOT/vendor/` (não
depende de internet nas próximas vezes), e criei **`BOT/setup_bepinex.ps1`**
+ **`BOT/setup_bepinex.bat`** (duplo-clique): reinstala o BepInEx se
ausente, recompila o plugin, copia pro `BepInEx/plugins/`. Rodar sempre que
o jogo atualizar de novo e apagar a pasta (fechar o jogo antes — o
`winhttp.dll` do BepInEx fica travado com o processo aberto).

**Combat logs agora sendo salvos**: usuário perguntou se eu estava
guardando os logs que ele manda — não estava (só existiam na conversa, e
o update do simulador apagou os originais). Criei `BOT/test_logs/` e
copiei os 2 logs desta sessão (`2026-07-09T16.07.36.log`,
`2026-07-09T16.12.30.log`) pra lá. Adotar esse hábito daqui pra frente.

**1. Bartholomew Kuma dando DON restado pra si mesmo em vez do líder —
MESMA causa raiz do Sanjuan Wolf (bloco 108), ainda não generalizada.**
`OP16-093`: "[On Play] ... give up to 1 rested DON!! to your Leader or 1
of your Characters" — o parser nunca captura `target` pra `give_don`
(só decide `give_don` vs `give_don_opp`, sem granularidade lider/personagem
dentro do próprio lado), então esse padrão não caía em NENHUMA das
detecções `actor_*` de `order_target_candidates` — ficava no fallback
genérico de zona, e como o Kuma tinha acabado de entrar e era o único
personagem em campo, "ganhava" por eliminação. Fix: unifiquei
`actor_self_power_target` pra guardar `('set', valor)` (Sanjuan Wolf,
Devon etc — poder vira N fixo) OU `('delta', +1000*count)` (`give_don` —
cada DON soma 1000 permanente). Mesma checagem de sobrevivência do líder
nos dois casos; pro caso `delta` (onde o ganho é IGUAL em qualquer alvo,
não existe "quem se beneficia mais"), desempate novo: nunca prefere o
próprio ator se ele acabou de entrar em campo (`just_played`, sem Rush
não briga esse turno) — o líder, que nunca tem `just_played`, ganha por
padrão. Validado com teste direto + `smoke_test.py` 100% +
`smoke_test_broad.py` 40/40.

**2. Bot atacou com St. Topman Warcury travado pelo Teach OP09-093 do
usuário — bug REAL confirmado (não falso alarme de expiração natural),
causa raiz achada e corrigida no C#.** Contei os turnos no combat log:
o lock ("can't attack next turn") foi aplicado no turno do usuário, e o
Warcury atacou no EXATO turno seguinte (dentro da janela do lock) — não é
coincidência de timing. Investigando o decompilado: `StartAttack()`
(chamado pelo bot via reflection em `BotExecutor.cs`) **não valida** se o
personagem pode atacar — só checa `iConfusion` (mecânica diferente). A
checagem real (`CardCantAttack()`, que confere `bCantAttack`/`bCantRest`/
travas V3/`CantAttack` de card action) só roda na camada de CLIQUE do
jogo (`FindPossibleCardActions`), que decide se ele SEQUER oferece o
personagem como atacante clicável — nosso bot pula essa camada
inteiramente (seta `go_PendingChoice` direto e chama `StartAttack()`).
**Fix de verdade, não workaround**: `GameStateDto.cs` ganhou o campo
`cantAttack`; `GameStateBuilder.cs` chama `CardCantAttack()` via reflection
(mesmo método que o jogo usa) ao montar o DTO de cada personagem;
`server.py` seta `card.cannot_attack_until = 'live_lock'` quando
`cantAttack=true` — reaproveitando o filtro que **já existia** em
`_generate_and_score_actions` (`not c.cannot_attack_until`), nunca
alimentado por dados reais do jogo ao vivo antes disso (só por simulação
interna). Isso é geral: cobre QUALQUER efeito de trava de ataque
(`bCantAttack`, travas V3, `CantAttack` de card action), não só o Teach
especificamente. Validado: teste direto ponta-a-ponta (DTO→Card→
`cannot_attack_until`), `smoke_test.py` 100%, `smoke_test_broad.py` 40/40.

### Operacional
DLL recompilada com o fix do `cantAttack` e copiada automaticamente pro
`BepInEx/plugins/` (confirmado: mesmo tamanho/timestamp nos dois lugares).
**O jogo estava ABERTO com a DLL antiga carregada em memória — precisa
fechar e reabrir pra pegar esse fix.** Server reiniciado com os 2 fixes
Python (`give_don` + `cantAttack` plumbing). `BOT/vendor/` (zip do
BepInEx) e `BOT/test_logs/` são novos, considerar se devem entrar no git
(binário de terceiro + logs de teste — talvez `.gitignore` seja melhor
pro zip, mas os logs valem a pena versionar).

---

## 2026-07-08 (108) - Claude

### Fix do Sanjuan Wolf (bloco 107) NÃO tinha pegado de verdade — causa raiz real era outra + achado grosso na função central de avaliação de carta

Usuário testou de novo (`2026-07-08T02.20.14.log`) e reportou 3 pontos.

**1. Fix do Sanjuan Wolf do bloco 107 confirmado FALHO — causa raiz real
achada e corrigida.** Mesmo comportamento de novo (Pizarro em vez do
líder). Investigando o `LogOutput.log` desta partida: o estado do jogo no
momento da escolha é `Life_ActivateTrigger` — NÃO está na lista de estados
`Attack_WaitOnBlocker/BeforeBlocker/WaitOnCounters` que o C#
(`BotDriver.cs HandlePendingAction`) usa pra calcular `atkPower`. Ou seja
`attacker_power` chega **sempre 0** nesse cenário (qualquer trigger de
vida), e minha regra de "líder sobrevive ao boost" (bloco 107) dependia
justamente de `attacker_power > 0` — nunca tinha chance de disparar.
Fix real: a regra agora usa o ESTADO DO TABULEIRO do oponente diretamente
(`opp_gs.field_chars`/`opp_gs.leader` ainda ativos = ameaça real), mesma
conta de `maior_por_vir` já usada em `resolve_reaction`, em vez de
depender do parâmetro `attacker_power` que só o C# preenche em 3 estados
específicos de ataque. Isso é mais robusto E mais geral: funciona
independente de QUAL estado do jogo a escolha de alvo aparece. Validado
com 2 cenários diretos (ameaça ativa suficiente pra matar sem boost mas
não com boost → prioriza líder; sem ameaça ativa → volta pro "quem
beneficia mais"). `smoke_test.py` 100%, `smoke_test_broad.py` 40/40.

**Lição reforçada**: o fix de ontem (107) tinha teste direto que PASSOU,
mas o teste testava um cenário sintético (`attacker_power=6000`) que eu
inventei sem confirmar que o C# realmente preenche esse valor pra ESSE
tipo de trigger. Teste passando != cenário real coberto — só o log real
do usuário revelou isso. Reforça [[feedback-fixes-globais-nao-pontuais]].

**2. Black Hole vs Shiryu no custo do redirect — observação válida, NÃO
corrigida.** Usuário sugeriu trashar 1 Shiryu (`OP16-108`, tinha 3-4
cópias na mão) em vez do Black Hole (`OP09-098`) como custo do redirect do
Teach, porque Shiryu tem sinergia recursiva (`[On Play] trash 1 carta:
recupera até 1 Blackbeard Pirates custo≤6 da lixeira pra vida face-up` —
uma cópia trashada podia ser recuperada por OUTRA cópia jogada depois).
`_trash_value`/`avaliar_carta` não sabem raciocinar sobre "essa carta é
recuperável porque tenho outra cópia sinérgica na mão" — é um tipo de
avaliação bem mais sofisticado (contar cópias, cross-referenciar
`play_from_trash`/`add_from_trash_to_life` na mão) que não tentei
implementar às pressas. Registrado pra sessão futura com mais tempo
dedicado — não é um bug simples, é uma lacuna de sofisticação real.

**3. "Bot desce carta de custo baixo e evita as bombas do deck" — achado
GRANDE, raiz confirmada, NÃO corrigido (escopo grande demais pra essa
sessão).** Testei diretamente `avaliar_carta` (função central, usada em
`_trash_value`, `_score_play_action`, `choose_to_trash` — dezenas de
pontos de decisão) com cartas reais do banco, DON e vida realistas:

```
OP16-102 Avalo Pizarro (custo=1, poder=2000):  avaliar_carta=125
OP16-109 Doc Q          (custo=1, poder=0):     avaliar_carta=120
OP16-108 Shiryu         (custo=6, poder=8000):  avaliar_carta=140
OP09-093 Teach          (custo=10,poder=12000,Blocker): avaliar_carta=100
```

Confirma o padrão relatado: o Teach de custo 10 (uma "bomba" de verdade —
12000 de poder, Blocker, Activate:Main forte) pontua MENOS que um
personagem de custo 1. Causa: `card.power / 1000 * 5` (escala de poder)
é fraco (+60 pro Teach de 12000) comparado à pilha de bônus fixos que
cartas baratas de sinergia acumulam (draw +25, busca +30, on-KO +35,
trigger +10, jogabilidade imediata +40) — o "tamanho"/investimento de
DON da carta não é recompensado proporcionalmente. Essa é a MESMA função
usada em dezenas de lugares do engine (não só "jogar carta") — mudar os
pesos sem validação ampla é arriscado. **Decisão consciente: não mexi
nisso agora** (sessão já muito longa, mudança de escopo grande, função
central demais pra alterar sem tempo de validar direito) — registrado
aqui com números concretos pra próxima sessão focar nisso com atenção
dedicada, não como patch rápido no fim de uma sessão de 6+ horas.

### Operacional
Server reiniciado com o fix real do Sanjuan Wolf. Pendências claras pra
próxima sessão, em ordem de impacto: (a) rebalancear `avaliar_carta`
pra recompensar poder/custo proporcionalmente — achado #3, maior
impacto; (b) ensinar `_trash_value` a reconhecer sinergia recursiva
(cópias recuperáveis) — achado #2, mais raro/específico; (c) gap do
parser de `OP09-093` (só captura 1 de 3 efeitos, bloco 107) ainda
pendente.

---

## 2026-07-08 (107) - Claude

### Achado GRANDE: "contexto de ataque" vazando pra QUALQUER escolha de alvo — causa raiz comum dos 2 reports desta partida (Sanjuan Wolf + Teach OP09-093)

Usuário mandou combat log de partida nova (`2026-07-08T01.18.57.log`) com
2 observações, e pediu explicitamente pra não resolver só pra carta
específica. As duas investigações levaram à MESMA causa raiz em
`order_target_candidates` (`scriptis_da_ia/optcg_engine/sim_bridge.py`).

**Causa raiz**: a variável `attacker_power > 0` era usada como proxy pra
"estamos resolvendo um redirect" — mas na verdade só significa "estamos
numa janela de ataque" (`Attack_WaitOnBlocker/BeforeBlocker/WaitOnCounters`
no C#). QUALQUER escolha de alvo que aconteça durante essa janela —
inclusive de uma ability completamente diferente, sem nenhuma relação com
redirecionar ataque — reaproveitava as heurísticas de redirect
(`own_hand`/`own_board`/`own_leader` pontuados por `_trash_value`/
`redirect_option_value`/`life_redirect_cost`). Corrigido: nova flag
`actor_is_redirect` (mesmo padrão de `actor_copia_poder`/
`actor_debuff_swing` — inspeciona os steps do `actor_code` procurando
`redirect_attack_target`) agora GATE-KEEPER de todo `attacker_power > 0`
nessas zonas. Só entra na lógica de redirect quem realmente TEM essa
ability.

**1. Sanjuan Wolf redirecionado pro Pizarro em vez do líder** — a ability
real (`OP16-106`, on-KO: "up to 1 of your Leader or Character's power
becomes 7000") não é redirect nenhum, é um auto-buff que o usuário viu
disparar durante uma janela de ataque (life trigger). Sem o gate acima,
ela caía nas heurísticas de redirect por acidente. Fix adicional (não só
o gate): nova detecção genérica `actor_self_power_target` (mesmo padrão —
qualquer carta com `set_base_power`/`buff_power` target=
`leader_or_own_character`) que:
  - por padrão prefere quem tem MENOR poder atual (fixar um valor alto
    beneficia mais quem estava mais fraco — maior delta);
  - EXCETO quando o líder está sob ataque AGORA e o boost fixo é
    suficiente pra ele SOBREVIVER um golpe que hoje não sobreviveria —
    aí o líder ganha prioridade máxima (sobreviver > qualquer delta de
    poder solto). Isso bate com a intuição do usuário nesse caso
    específico, sem hardcode pro Sanjuan Wolf — qualquer carta futura com
    esse padrão textual ("gains X or Y" trocado por "power becomes N")
    herda o comportamento.

**2. Teach OP09-093 — usuário "teve que escolher os alvos"** — log do
plugin (`LogOutput.log`) confirma que o bot NÃO travou: ativou a
habilidade (`activate: OP09-093`) e ficou tentando alvo por alvo, só que
a ORDEM começava pela própria mão/campo (candidatos genéricos de zona
`own_hand`/`own_board`, prioridade estrutural 1/3) antes de chegar nos
candidatos válidos do oponente (`opp_board`, prioridade 4) — 15+ cliques
inválidos (~0,8s cada, ~12s+) até acertar, tempo suficiente pro usuário
perder a paciência e clicar primeiro. A ability real (`OP09-093`: "negate
the effect of up to 1 of your opponent's Leader/Character") só tem alvo
do lado do OPONENTE — nenhuma zona `own_*` é válida nunca. Fix genérico:
nova flag `actor_opp_only` — se TODOS os `target` declarados nos steps do
`actor_code` começam com `opp` (qualquer carta, não só essa), todas as
zonas `own_*` caem pra prioridade mínima (9), garantindo que candidatos
do oponente sempre vêm primeiro.

**Gap secundário achado, não corrigido**: `card_effects_db.json` de
`OP09-093` só capturou 1 dos 3 efeitos do texto real (falta "negate
opponent's Leader" e "can't attack until end of next turn" — só
"negate opp Character" foi parseado). Não afeta o bug corrigido acima
(que dependia só do `target` do step existente), mas o bot provavelmente
subestima o valor de ativar essa ability na hora de decidir. Registrado
pra próxima sessão avaliar o parser dessa carta.

Validado: 3 cenários de teste direto (Sanjuan Wolf com líder sobrevivendo
ao boost / sem ataque em andamento / boost insuficiente) todos bateram
com o esperado; teste direto do Teach OP09-093 confirmou candidato do
oponente vindo primeiro. `smoke_test.py` 100% (múltiplas rodadas ao longo
do trabalho). Mudança é 100% Python puro (`sim_bridge.py`) — não precisou
`gerar_dbs.py`, só reiniciar o server.

### Operacional
Ambiente com bastante flakiness de processos em background nesta sessão
(vários `smoke_test_broad.py` ficaram presos/mudos sem razão aparente,
não relacionado ao código do projeto) — rodei o smoke test amplo várias
vezes até confirmar 40/40 limpo. Server será reiniciado com todos os
fixes de hoje (blocos 105+106+107) antes do usuário testar de novo.

---

## 2026-07-08 (106) - Claude

### Nova partida real: 2 reports do usuário viraram "não é bug" (Nusjuro condicional, trash vazio) + achado de verdade (Catarina Devon OP09-084) + log de mão fina

Usuário mandou combat log de outra partida (`2026-07-08T00.37.06.log`) com
2 reports:

**1. "Nusjuro atacou e não consegui usar meu when attacking, o bot já saiu
trashando carta antes"** — investigado e é **comportamento correto, não
bug**. Texto real do Nusjuro (`OP13-080`): "[When Attacking] **If you have
10 or more cards in your trash**, give up to 1 opponent Character -2000
power". No ataque reportado (turno 3), a lixeira do atacante tinha
**9 cartas** (contado direto no combat log) — condição não bate, o jogo
não oferece a habilidade, não tem nada pra "roubar" via timing. No 2º
ataque do mesmo Nusjuro (lixeira com 11), o debuff disparou normalmente,
confirmando que a condição É respeitada nos dois casos.

**2. "BOT não sabe ativar/escolher o efeito da Catarina Devon"** —
usuário citou o código errado (`OP09-081`, que na verdade é uma variante
do líder Teach, efeito totalmente diferente). Card real (foto confirmada
pelo usuário): **`OP09-084`** — "[Activate: Main][Once Per Turn] If your
Leader has the Blackbeard Pirates type, this Character gains **[Double
Attack], [Banish] or [Blocker]** until the end of your opponent's next
turn." **Achado real aqui, e é geral (não pontual)**: o parser
(`gerar_effects_db.py`) tem uma regex pra "gains [A], [B] or [C]" (janela
de lista compartilhada) que appenda cada keyword como STEP INCONDICIONAL
SEPARADO — ou seja, o motor achava que a carta ganhava as 3 keywords DE
GRAÇA simultaneamente, em vez de ser uma ESCOLHA de 1. Isso silenciosamente
"funcionava" (dava tudo de graça) só que como um efeito enorme e errado —
não bate com o sintoma relatado ("bot não sabe escolher"), mas de qualquer
forma estava semanticamente errado e merecia fix. Fix: quando a lista
compartilhada contém `' or '`, vira `{'_choice': [[gain_a],[gain_b],[gain_c]]}`
em vez de steps paralelos — mesmo formato usado por 19+ cartas com "Choose
one: • ...". Só 1 carta no banco inteiro tinha esse padrão específico
(`OP09-084`, a `_p1` parallel não conta separado), mas o fix é genérico
(detecta pelo padrão textual "or" na lista, não hardcoded pro código da
carta) — qualquer carta futura com esse texto ganha o comportamento
certo automaticamente. `EffectExecutor.execute()` já resolve `choice`
genericamente pra QUALQUER trigger (`activate_main` incluso, confirmado
lendo o código) via `_resolve_choice`, que escolhe a opção viável de
maior peso heurístico — sem peso específico pra
double_attack/banish/blocker (todas caem no default=1), então empate
sempre escolhe a primeira da lista (`gain_blocker`, pela ordem que
construí) — não é estratégico, mas é MUITO melhor que "ganha as 3 de
graça" ou "nunca ativa". Validado: `diff_parser.py` GANHOU=0 PERDEU=0
MUDOU=1, `smoke_test.py` 100%, `smoke_test_broad.py` 40/40 (2x, antes e
depois do log de mão fina).

**Achado à parte, NÃO investigado a fundo (duration)**: o texto real diz
"until the end of your opponent's next turn" — esse padrão de duração
específico NÃO é reconhecido em lugar nenhum do código (`grep` zero
ocorrências). O keyword-grant provavelmente vira permanente em vez de
expirar no tempo certo. Pré-existente, não piorado por este fix, mas
registrado aqui pra próxima sessão avaliar.

### 3. Usuário reportou (sem log ainda, observação de partida ao vivo): bot
jogando excessivas cartas de custo 1-2 (algumas com Counter alto, tipo
+2000) até ficar sem carta na mão, facilitando o ataque do oponente.
Investigado: **já existe uma proteção** (`_generate_and_score_actions`,
achado de uma partida real de 04/07 documentado no próprio código) que
penaliza jogar quando `len(hand) <= 3`, mas essa penalidade é POR
CONTAGEM, não pesa se a carta específica tem Counter alto (mais valiosa
guardada pra defesa). Decidi **não ajustar a heurística às cegas** —
mesmo espírito das auditorias de hoje (não repetir o erro que já cometi
uma vez nesta sessão, de quase declarar bug sem prova sólida; aqui seria o
inverso, ajustar peso sem prova de que o ajuste certo). Em vez disso,
adicionei log `[PLAY]` em `sim_bridge.py choose_action()` (só dispara
quando a mão já está com ≤3 cartas ANTES da jogada, pra não poluir turnos
normais): mostra código/custo/counter da carta jogada e o score. Vai
aparecer no stdout do server na próxima partida — dá pra auditar com
números reais se a régua de preservação de mão está ou não protegendo
carta de counter alto o suficiente, em vez de eu ficar comparando na mão.

### Operacional
Server reiniciado com todos os fixes de hoje (bloco 105 + este). Matei
vários processos `smoke_test_broad.py` que ficaram presos em background
por causa do harness (não sei a causa raiz, mas não tem relação com o
código do projeto). `card_effects_db.json`/`card_analysis_db.json`
regenerados e ressincronizados (`gerar_dbs.py`) com o fix da Catarina
Devon. `C:/Users/arthu/AppData/Local/Temp/optcg_server.log` continua
sendo o arquivo de log persistente do server — ler depois da próxima
partida (`grep "\[REACTION\]\|\[PLAY\]"`).

---

## 2026-07-07 (105) - Claude

### Tentativa de auditar as outras 6 recusas offline — abandonada por falta de confiabilidade; log de diagnóstico ao vivo adicionado no lugar

Usuário pediu pra auditar as outras 6 recusas (não-letais) da mesma
partida do bloco 104 antes de testar de novo. Reconstruí manualmente o
estado (mão/campo/vida) de cada golpe usando os codes reais do Combat Log
e chamei `resolve_reaction`/`redirect_option_value`/`life_redirect_cost`
de verdade (script em `C:/Users/arthu/AppData/Local/Temp/audit_teach.py`,
não versionado). Pra 2 dos golpes reconstruídos (vida 4 e vida 3), o
resultado deu `True` — ou seja, minha reconstrução dizia que o engine
DEVERIA ter aceitado, contrariando o que o log real mostrou (`Cancel`
nos 2 casos).

**Não tratei isso como bug confirmado.** Investiguei a causa mais provável
da divergência: `_trash_value` (usada pra `custo_carta`) tem um bônus de
até `60 + custo*6` se a carta for jogável AGORA (`custo <=
self.me.don_available`) — e meus `GameState` sintéticos tinham
`don_available=0` (default), o que SUBESTIMA `custo_carta` artificialmente
baixo comparado à partida real (onde o bot tinha DON de verdade
disponível). Reconstruir `don_available` exato por turno a partir só do
Combat Log é frágil (o log não expõe isso de forma direta e não auditei
com confiança suficiente pra apontar um segundo bug). **Decisão: não
declarar bug sem certeza — isso violaria a mesma lição que guardei na
memória ontem** (fix "genérico" não é sinônimo de "completo"; aqui o
risco seria o oposto, declarar bug sem prova sólida).

**Em vez de continuar adivinhando offline, adicionei log de diagnóstico
DIRETO no `resolve_reaction`** (`scriptis_da_ia/optcg_engine/
sim_bridge.py`): toda chamada agora imprime uma linha `[REACTION] atk=...
def=... life=... don_disp=... -> True/False (motivo)` no stdout do server,
com os números REAIS (`custo_carta`, `salva`, `opcoes`, `ganho`,
`maior_por_vir`) usados na decisão — em vez de eu reconstruir o estado de
memória, a próxima partida real vai gerar os números de fato. Validado:
`smoke_test.py` 100%, `smoke_test_broad.py` 40/40 (print não quebra nada).

### Operacional
Server reiniciado (matei o processo antigo na porta 8765) redirecionando
stdout/stderr pra um arquivo persistente:
`C:/Users/arthu/AppData/Local/Temp/optcg_server.log` — os processos
`run_in_background` anteriores morreram sozinhos entre turnos desta sessão
(motivo não investigado, pode ser o processo pai da sessão encerrando);
usar esse arquivo de log é mais confiável pra checar depois do teste do
usuário do que depender do rastreamento do harness. Health check OK.

### Pendente
Próxima sessão (ou eu mesmo, se o usuário testar ainda nesta sessão): ler
`C:/Users/arthu/AppData/Local/Temp/optcg_server.log` (grep `[REACTION]`)
depois da próxima partida real e comparar os números de verdade contra o
que o bot decidiu — aí sim dá pra confirmar ou descartar bug nas recusas
não-letais. O fix do golpe letal (vida 0, bloco 104) continua válido e
já está no server rodando.

---

## 2026-07-07 (104) - Claude

### Partida real pós-fix #103: detecção funciona, mas `resolve_reaction` recusava até o golpe que perdeu o jogo — bug de heurística achado e corrigido

Usuário jogou uma partida completa com a DLL do bloco 103 e mandou o
Combat Log (`2026-07-07T23.46.53.log`) + feedback: "achei que deu uma
melhorada, mas precisamos melhorar algumas coisas ainda". Cruzando o
Combat Log com o `LogOutput.log` do plugin (mesma sessão):

**Boa notícia**: a detecção funciona. `[Bot] custo opcional sem tela
dedicada (reacao): ...` apareceu 8 vezes ao longo da partida — o bot não
trashou mais carta às cegas em todo ataque (bug do bloco 102/103
efetivamente resolvido).

**Problema novo**: em TODAS as 8 vezes o engine respondeu `Cancel` —
inclusive na última, que foi o golpe que **terminou o jogo** (5º acerto no
líder Teach; os primeiros 4 levaram a vida de 4 a 0, e por regra do OPTCG
tomar dano com vida 0 = derrota imediata). Confirmado via
`grep "hit for 1 damage"` no Combat Log (5 ocorrências) + a última entrada
`[Bot] custo opcional... Cancel` no `LogOutput.log` bate exatamente com
esse 5º golpe (`actor=OP13-080`, St. Ethanbaron V. Nusjuro, mesmo atacante
do Combat Log).

**Causa raiz** (`resolve_reaction`, `scriptis_da_ia/optcg_engine/
sim_bridge.py`): `life_redirect_cost(life_count)` trata vida=0 igual a
vida=1 (cai no mesmo teto de 90, `dict.get(0, 90.0)`), na MESMA régua
numérica usada pra comparar contra o custo de sacrificar uma carta
(`custo_carta`, tipicamente 40-90+ pra mão boa). Conceitualmente errado:
com vida 0, esse golpe não é "perder mais 1 vida" — é perder a PARTIDA
INTEIRA, que não é comparável a nenhum valor de carta. Fix: bypass
explícito — quando o ataque é no líder (`defender_char is None`) e
`my_life == 0`, redireciona sempre que existir QUALQUER alvo legal (mesmo
que vá morrer sem on-KO bom), sem passar pela conta normal de
ganho/custo nem pela guarda de "segurar a reação pro ataque maior" (não
existe "turno que vem" se perder agora).

Validado com teste direto (`Card`/`GameState` construídos à mão, 3
cenários: vida=0 com alvo → `True`; vida=4 mesmo cenário → comportamento
normal preservado; vida=0 sem nenhum personagem no campo → `False`,
correto, sem alvo legal pra redirecionar). `smoke_test.py` 100%,
`smoke_test_broad.py` 40/40. Engine puro (Python), sem mudança de parser
— não precisou `gerar_dbs`. Server reiniciado (matei o processo antigo na
porta 8765 e subi de novo) pra carregar o fix.

### Pendente
Usuário mencionou "algumas coisas" no plural — só achei e confirmei UM bug
concreto (o de vida 0) com evidência forte (log real). As outras 7 recusas
da partida não foram auditadas uma a uma (podem estar corretas — mão
disponível vs. ameaça pequena, ou podem esconder outro problema de tunagem
não tão óbvio quanto o de vida 0). Não fiz DLL nova nesta rodada (mudança
foi só Python/server) — não precisa reabrir o jogo, só o server já
reiniciado é suficiente. Próximo passo: jogar mais uma partida e ver se o
Teach agora redireciona corretamente perto de vida 0; se sobrar tempo,
auditar as outras recusas dessa mesma partida uma a uma pra achar o que
mais o usuário quis dizer com "algumas coisas".

---

## 2026-07-07 (103) - Claude

### Causa raiz real do Teach achada e corrigida (fix #1 do bloco 102 era necessário mas insuficiente) + gap do parser fechado

Usuário testou de novo (ataque com Saint Shalria) e confirmou que o Teach
continuava trashando toda vez, mesmo sem valer a pena. Log real
(`LogOutput.log`) confirmou: `downside=False` mesmo com o fix do heartbeat
ativo, no exato momento em que `actor=OP16-080` aparece com `aca=True
mine=True` — ou seja, essa ability específica **nunca** passa pela tela de
oferta dedicada (Cancel/UseOnPlay ou Cancel/UseV3OnPlay). Ela pula direto
pra seleção do alvo do custo ("Select 1 Cards to Trash", só com Cancel),
que é exatamente o que o print do usuário já tinha mostrado no bloco
anterior.

**Causa raiz confirmada no decompilado**: `SetupPendingActionTargets`
(V3) só monta a tela dedicada quando `actV3Step.details.ConfirmAction ==
true`. Pra essa habilidade do Teach esse flag não está setado — o
"aceitar/recusar" fica embutido na própria seleção do alvo do custo. Isso
significa que o fix #1 do bloco 102 (ler `UseOnPlay`/`UseV3OnPlay` na tela)
continua válido e necessário pra cartas que TÊM a tela dedicada, mas não
cobre esse padrão — precisava de um segundo sinal.

**Fix novo, também GERAL (não hardcode pro Teach)**: `ActV3Effect.TrashCard`
é o mesmo campo que o próprio jogo usa (`PopulateV3Choice`) pra montar o
botão "Select N Cards to Trash" — presente em QUALQUER carta com esse
padrão de custo, não só o Teach. `BotExecutor.IsOptionalHandTrashCost(gls)`
(novo, `BotExecutor.cs`) verifica: step atual é V3, marca `effect.TrashCard`,
e o botão `Cancel` está realmente disponível na tela (se não tem Cancel, o
custo é obrigatório — parte de uma ação já confirmada, não deve ser
perguntado). `BotDriver.cs` (`Update()`) agora, antes de deixar
`HandlePendingAction` escolher automaticamente um alvo, checa esse sinal na
1ª vez que a ação pendente aparece (`_downsideCheckedFor`, mesmo padrão de
`_pendingRef`) e pergunta pro engine via `resolve_reaction`/
`resolve_optional_effect` (extraído pro helper `ShouldUseOptionalCost`,
compartilhado com o branch da tela dedicada — elimina a duplicação que
existia antes). Se o engine recusar, cancela a ação em vez de trashar a
pior carta da mão automaticamente.

**Gap do parser também fechado** (`scriptis_da_ia/gerar_effects_db.py`):
o texto do redirect do Teach ("Change the target of **that** attack...")
não batia com a regex antiga (`'change the attack target' in t` — ordem de
palavras diferente da de Doflamingo OP14-060/"Oh Come My Way" EB01-038,
que usam "Change the **attack target**..."). Regex trocada por
`change the (?:attack target|target of (?:that|this) attack)` (cobre as
duas ordens) + filtro de tipo simplificado pra casar só `\{X\} type
character(s)` (em vez de tentar casar a frase inteira ao redor, que também
variava). Validado: `diff_parser.py` → GANHOU=0 PERDEU=0 MUDOU=1 (só
OP16-080), `card_effects_db.json` agora tem
`on_opp_attack: {steps: [redirect_attack_target filter_type=blackbeard
pirates], costs: [trash_from_hand count=1]}` pra ele (o campo `costs` veio
de um mecanismo do parser que já existia, só nunca disparava porque o
bloco inteiro ficava vazio antes). `smoke_test.py` 100%,
`smoke_test_broad.py` 40/40 depois do `gerar_dbs.py` + re-snapshot.
Esse gap não bloqueava o fix comportamental acima (`resolve_reaction`/
`order_target_candidates` já eram genéricos, não liam o banco pra esse
caso), mas deixava a `card_analysis_db.json` incompleta pra qualquer coisa
que dependa de conhecer essa ability (auditoria, front-end, etc.).

### Pendente pra confirmar
DLL recompilada de novo com o fix novo (`IsOptionalHandTrashCost` +
`ShouldUseOptionalCost`) e copiada pro `BepInEx\plugins\` — **precisa
fechar e reabrir o jogo** (a instância que estava rodando ainda tem a DLL
anterior, sem esse fix). Server Python reiniciado (matou a instância antiga
que não respondia mais a `/health` — pode ter caído sozinha entre as
sessões — e subiu de novo com `card_effects_db.json` atualizado). Depois de
reabrir o jogo: repetir o mesmo teste (atacar o Teach com Saint Shalria ou
qualquer outro atacante) e confirmar no log `[Bot] custo opcional sem tela
dedicada (reacao): USAR efeito / Cancel` aparecendo — e principalmente,
que o Teach **não trasha mais em todo ataque indiscriminadamente**.

---

## 2026-07-07 (102) - Claude

### Pendência 1 resolvida (fix GERAL, não hardcode do Teach) + pendência 2 (toggle de tecla)

Seguindo a ordem pedida pelo usuário no bloco 101.

**1. `IsOfferingDownside` (`BOT/OPTCGBotPlugin/BotExecutor.cs`) reescrito pra
ler os botões REAIS na tela em vez do campo interno `bOfferingDownside`.**
Causa raiz confirmada no decompilado
(`_referencias/simulador-oficial/dnspy-export/Assembly-CSharp/GameplayLogicScript.cs`):
`bOfferingDownside` só é setado em `StartUsingAction_DEPRECATEME` (linha
~30796), o sistema de ações **legado**. O sistema **V3** — usado pela
maioria das cartas novas, Teach incluso — resolve o mesmo diálogo
Cancel/Usar em `SetupPendingActionTargets` → branch `ConfirmAction` (linha
~30567-30580) e nunca toca esse campo. Ou seja, não era um bug específico
do Teach: **qualquer carta/líder com custo opcional portado pro V3** tinha
esse mesmo problema (o bot nunca perguntava pro engine, sempre usava a
ability "no escuro"). Os dois sistemas, porém, ativam os MESMOS botões de
UI (`ButtonChoiceType.UseOnPlay` no legado, `UseV3OnPlay` no V3) via
`AddChoice` — sinal público (`go_ChoiceButtonN` + `ChoiceButtonScript.myType`,
ambos `public`), igual ao que o jogador vê na tela. Fix: reaproveitado o
helper `OfferedButtons` que já existia no arquivo (usado por
`ConfirmPendingSelection`) — `IsOfferingDownside` agora verifica se algum
botão ofertado é `UseOnPlay` OU `UseV3OnPlay`, cobrindo os dois sistemas
pra qualquer carta. Reflection do campo antigo (`_fOfferingDownside`)
removida.

**2. Toggle de tecla Shift+B pra ligar/desligar o bot em tempo real**
(`BOT/OPTCGBotPlugin/BotDriver.cs`, `Update()`; documentado em
`BOT/README.md`). Campo `_botEnabled` (bool, default true) checado logo no
início do `Update()`, antes de qualquer leitura de estado do jogo — Shift
(esquerdo ou direito) segurado + `Input.GetKeyDown(KeyCode.B)` alterna e
loga `[Bot] ATIVADO/DESATIVADO (Shift+B)`; quando desativado, `Update()`
retorna imediatamente (nenhum side effect). Ao reativar, dá um cooldown de
1s antes de agir de novo (evita ação no mesmo frame que o usuário acabou de
mexer). Precisou adicionar referência nova no `.csproj`
(`UnityEngine.InputLegacyModule.dll`, já existe em
`OPTCGSim_Data/Managed/`) — `UnityEngine`/`UnityEngine.CoreModule` sozinhos
não expõem a classe `Input` nessa versão do Unity. (Primeira versão usava
F9 isolado; trocado pra Shift+B a pedido do usuário — tecla única sozinha
tinha mais chance de colidir com algum atalho do jogo/OS.)

Ambos os itens só têm testado até "compila limpo" (`dotnet build`, 0
erros) — **não testado em partida real ainda** (não é algo que dê pra
validar por script/smoke test, precisa rodar o jogo). Próxima sessão (ou
o usuário jogando manualmente) deve confirmar: (a) o log agora mostra
`[DEF] reaction`/`[DEF] optional` quando o Teach ou qualquer outra carta
V3 oferece o diálogo de custo opcional; (b) a tecla F9 liga/desliga o bot
sem quebrar nada.

### Ajustes ao vivo (mesma sessão, depois do primeiro teste do usuário)

1. **Tecla trocada de F9 pra Shift+B** (a pedido do usuário — F9 sozinha
   tinha mais chance de colidir com algum atalho do OS/jogo). Documentado em
   `BOT/README.md`.
2. **Bug achado no próprio toggle**: o heartbeat de diagnóstico (`[HB] ...
   downside=...`) só rodava quando `_botEnabled=true` — pausar com Shift+B
   também SILENCIAVA os logs que a gente precisa pra ver se `downside=True`
   aparece no momento certo (o motivo de existir o toggle). Corrigido:
   heartbeat agora roda sempre (adicionado campo `enabled=` na mensagem);
   só a execução de ações fica condicionada a `_botEnabled`.
3. **Achado novo**: a habilidade de redirect do Teach ("You may trash 1
   card with a [Trigger] from your hand: Change the target of that
   attack...") **não está no `card_effects_db.json`** — só o efeito de
   custo (`opp_turn: buff_cost`) foi parseado, o redirect ficou de fora.
   Gap do parser (`gerar_effects_db.py`), registrado aqui mas não
   investigado ainda — não deveria travar `resolve_reaction` (que é
   genérico e não lê o banco pra esse caso específico), mas fica pendente
   de confirmação.
4. **Print real do usuário** (Imu [OP13-079] atacando o líder Teach,
   turno 2) mostrou a tela **"Select 1 Cards to Trash" com só o botão
   Cancel** — sem um par Cancel/UseOnPlay separado antes. Isso sugere que
   essa habilidade específica pode pular a etapa de "oferta" inteiramente
   (o Cancel já embutido na própria seleção do alvo do custo), o que
   invalidaria parte da hipótese do fix #1 pra ESSE caso específico —
   ainda não confirmado ao vivo (o log carregado no momento do print era de
   sessão anterior à DLL nova, sem o fix do heartbeat). **Próximo passo
   assim que o usuário reabrir o jogo com a DLL nova**: reproduzir o mesmo
   cenário, pausar com Shift+B, e ler o `LogOutput.log` pra ver se
   `downside=` vira `True` nesse instante ou não.

### Operacional
DLL recompilada e copiada automaticamente pro
`E:\Games\OnePieceSimulador\Builds_Windows\BepInEx\plugins\` (o `.csproj`
já tem um target `CopyToPlugins` pós-build) — **precisa fechar e reabrir o
jogo** pra carregar a versão mais nova (a que tem o fix do heartbeat).
Server Python (porta 8765) foi religado nesta sessão
(`python BOT/engine_server/server.py`, rodando em background) — health
check OK (`{"status":"ok"}`).

---

## 2026-07-07 (101) - Claude

### Fix real do debuff_power no caminho AO VIVO + achado grande: `IsOfferingDownside` nunca detecta a ability do Teach

Mais uma partida real (5ª de hoje) auditada pelo usuário. 2 coisas importantes:

**1. Fix #6 do bloco 100 só valia pra simulação, não pro jogo real — corrigido agora.**
O usuário reportou de novo o Van Augur debuffando -3000 num personagem já
restado (dessa vez o St. Jaygarcia Saturn) em vez do líder (ainda ativo).
Investiguei e achei a causa raiz certa dessa vez: meu fix de ontem no
`_execute_step`/`debuff_power` (decision_engine.py) só é usado pela
simulação INTERNA do Turn Planner. A escolha de alvo AO VIVO (quando o
jogo de verdade pede via `/choose_target`) passa por
`order_target_candidates` (sim_bridge.py), que eu não tinha tocado pra
esse caso — a zona `opp_board` lá é genérica pra REMOÇÃO (maior valor,
sem olhar `rested`) e `opp_leader` cai num catch-all de prioridade baixa,
então o líder quase nunca competia. Fix: detecção do padrão de efeito
(`actor_debuff_swing`, igual ao `actor_copia_poder` que já existia pra
copy-power) — quando o ator tem um step `debuff_power`, `opp_board` e
`opp_leader` são tratados juntos, priorizando quem está ATIVO (não
restado) antes de olhar valor. Testado isolado (líder ativo bate
personagem restado) e validado (`smoke_test.py` 100%, `smoke_test_broad.py`
40/40). Commit `4155623`.

**2. `IsOfferingDownside` nunca retorna true pra ability do Teach — confirmado, não é mais suspeita.**
O usuário reportou (e confirmou visualmente, existe um botão real no jogo)
que o "trash 1 [Trigger]: redirecionar ataque" do Teach parece ter uma
escolha de aceitar/recusar. Mas em NENHUMA das 5 partidas de hoje o
server Python imprimiu `[DEF] reaction` nem `[DEF] optional` — e o
heartbeat do próprio plugin (`[HB] ... downside=...`, já existia no
código, imprime toda vez que o estado muda) **nunca** mostrou
`downside=True` em nenhum momento do LogOutput.log inteiro (rodei
`grep "downside=True"` no log completo — zero ocorrências). Ou seja: a
função `BotExecutor.IsOfferingDownside(gls)` (que lê o campo
`_fOfferingDownside` via reflection) está checando o campo ERRADO do
estado interno do jogo pra essa ability específica — o jogo mostra um
botão real (usuário confirmou visualmente), mas nosso código nunca detecta
essa janela de decisão, então a ability é usada sem nunca passar pelo
`resolve_reaction`/`resolve_optional_effect` do motor. Isso explica os
achados dos blocos 99-100 que pareciam "o fix não pegou" (self-redirect
sem efeito, redirect de ataque de 0 poder que já ia falhar sozinho,
trashando carta à toa) — não é bug de decisão no Python, é a ability
sendo forçada sem nunca perguntar pro motor se vale a pena.

### Pendências pra próxima sessão (usuário pediu explicitamente)
1. **Achar o campo certo no jogo pra detectar essa ability.** Próximo
   passo: procurar no `_referencias/simulador-oficial/dnspy-export/`
   (GameplayLogicScript.cs e o V3 action script específico do Teach) por
   qual state/flag realmente controla esse diálogo — `_fOfferingDownside`
   está descartado como candidato (confirmado errado agora). Pode ser um
   state diferente de `PlayerTurn_Action`/downside, ou um campo novo que
   ninguém tinha mapeado ainda.
2. **Criar um toggle (tecla de atalho) pra ligar/desligar o bot em tempo
   real**, sem precisar reiniciar o jogo nem trocar a DLL de lugar —
   usuário quer isso pra poder jogar manualmente e printar telas de
   decisão sem o plugin clicar automaticamente antes de dar tempo. Dá pra
   fazer em `BotDriver.cs` (`Update()`, ~linha 29): checar uma tecla via
   Unity `Input.GetKeyDown` no início do método, com um `bool _botEnabled`
   que dá `return` cedo quando false. `Plugin.cs`/`BotDriver.cs` já são
   `MonoBehaviour`/`BaseUnityPlugin` com acesso a `UnityEngine`, então
   `Input` já está disponível sem dependência nova.

### Operacional
Server (porta 8765) está DESLIGADO no fim desta sessão (parado a pedido
do usuário pra tentar isolar o diálogo do Teach) — subir de novo com
`python BOT/engine_server/server.py` antes de qualquer teste novo. DLL do
plugin não mudou nesta rodada (só o fix de `order_target_candidates`, que
é Python puro).

---

## 2026-07-07 (100) - Claude

### 2 achados novos + fecha a sessão: on_ko_value sem peso pra debuff/set_power, self-redirect no-op (raiz incerta), abre tópico de combo estratégico

Sequência do bloco 99: rodei mais uma partida real (server reiniciado com
todos os fixes commitados) e o usuário auditou o log completo de novo.
2 achados novos, ambos em `on_ko_value`/redirect:

1. **`on_ko_value` não tinha peso pra `debuff_power`/`set_base_power`** —
   caíam no fallback genérico (`else: +8`). Sanjuan Wolf (`set_base_power`
   7000 no líder/personagem próprio) e Van Augur (`debuff_power` -3000 no
   oponente) empatavam em 23.0 apesar de serem efeitos MUITO diferentes em
   impacto — isso fez o Van Augur "ganhar" a escolha de redirect por ser
   mais barato de sacrificar (custo 1 vs 4), quando o Sanjuan Wolf (efeito
   bem mais forte: líder a 7000 de poder) devia ter sido escolhido. Fix:
   branch dedicado pra `debuff_power` (só conta se o oponente tem alvo
   ATIVO — mesma lição do achado #6 do bloco 99) e pra
   `set_base_power`/`buff_power` do NOSSO lado (peso pelo tamanho do
   swing). Validado: Sanjuan Wolf 51 vs Van Augur 39 com alvo ativo, Van
   Augur cai pra 15 sem alvo ativo nenhum.
2. **Self-redirect no-op**: no início de uma partida (log
   `2026-07-07T21.31.01.log`), o Teach "redirecionou" um ataque do líder
   PRA ELE MESMO (alvo original já era o líder, campo do bot vazio) —
   trashou o Black Hole à toa, zero ganho. Investiguei a fundo: testei
   `resolve_reaction` isolado com o cenário exato (campo vazio, alvo
   original = líder) e ele retorna `False` corretamente — MAS procurei no
   log real do server (155 linhas de stdout da partida inteira) por
   `[DEF] reaction` e **não achei NENHUMA ocorrência**, apesar de pelo
   menos 3 redirects reais terem acontecido nessa partida. Isso sugere que
   a ability do Teach pode não estar passando pelo gate
   `IsOfferingDownside` → `phase="reaction"` que o C# usa (ver
   `BotDriver.cs` ~linha 85-120) — foi direto pra escolha de alvo sem uma
   etapa de aceitar/recusar. **Não confirmei a causa raiz** (só dá pra
   confirmar com instrumentação ao vivo, não só lendo o combat log em
   texto) — não fiz um fix especulativo em cima de teoria não confirmada.
   Em vez disso, adicionei diagnóstico em `server.py` `/choose_target`:
   loga as zonas dos candidatos recebidos e um aviso explícito
   `[TGT][AVISO]` quando o alvo escolhido bate com o alvo original
   (self-redirect no-op detectado). Isso fica no stdout do server
   (`bvjlwph6w.output`-like, não no LogOutput.log do jogo) — checar isso
   manualmente na próxima partida, não pelo monitor ao vivo.

Ambos os fixes de `on_ko_value` validados (`smoke_test.py` 100%,
`smoke_test_broad.py` 40/40). Só Python, servidor precisa reiniciar.

### Resultado das 4 partidas reais de hoje: 4 derrotas, mesmo padrão

Rodei 4 partidas reais instrumentadas ao longo da sessão (2 antes dos
fixes, 2 depois). **O bot perdeu as 4**, sempre pelo mesmo motivo: Five
Elders do oponente reanima um board inteiro do trash num turno só
(Ju Peter + Ethanbaron + Warcury + Marcus Mars + Saturn) e fecha com o
Ethanbaron bufado. Os fixes de hoje (redirect, margem de counter, campo
cheio, on_ko_value) são reais e validados individualmente, mas nenhum
ataca esse padrão — são tudo correção tática pontual, não resposta
estratégica a um combo de virada. **Abri um tópico novo no TODO.md**
("consciência de combos estratégicos do oponente") documentando o padrão
observado e as perguntas de design em aberto — não escopado nem começado,
fica pra próxima sessão (ou continuação desta).

### Operacional
Server precisa reiniciar (server.py + decision_engine.py mudaram nesta
rodada). Nenhuma mudança em C#/DLL desta vez.

---

## 2026-07-07 (99) - Claude

### 2 partidas reais instrumentadas + 8 fixes (redirect/on-KO, margem de counter, campo-cheio, search, Stage no DTO)

Rodei 2 partidas reais contra o bot (server + plugin, SoloVSelf), auditando
decisão por decisão via log ao vivo (BepInEx LogOutput.log) + CombatLog
completo no fim de cada uma. Achados e fixes, todos em `decision_engine.py`
salvo indicação contrária:

1. **`on_ko_value` creditava `play_card` sem checar disponibilidade real**
   (partida 1: redirect do líder Teach escolheu Avalo Pizarro em vez de
   Vasco Shot — o bônus fixo de "jogar Fullalead do trash" valia +30 mesmo
   com o Fullalead já jogado antes, enquanto o Vasco Shot teria restado o
   Kuma do oponente de verdade). Fix: `_on_ko_play_card_value` (nova
   função) só credita se existir alvo elegível de verdade na mão/trash do
   dono (via `eligible_cards`), escalado pelo `board_value()` do achado.
   Testado com carta sem relação nenhuma (Brook/Laboon) pra confirmar que
   não é hardcoded pro caso reportado.
2. **Custo do redirect do líder era um número fixo (~25)**, ignorando o
   que realmente tem na mão. `resolve_reaction`/`order_target_candidates`
   (`sim_bridge.py`) trocados pra usar `EffectExecutor._trash_value` real
   (mesma régua de `_score_activate_main`) — protege carta jogável agora /
   ameaça cara em vez de sacrificar qualquer coisa por ganho marginal.
3. **`opp_counter_potential` só somava o stat impresso de counter**, nunca
   efeitos `[Counter] Activate` condicionais (Ground Death +4000 com
   trash≥10, "...Never Existed..." +4000 com líder Imu) — o bot atacava
   empatado sem margem e falhava contra essas cartas repetidas vezes na
   mesma partida. Fix: soma stat + `effects.counter.steps` (buff_power),
   validando as condições contra o estado real do oponente via
   `EffectExecutor._check_conditions`. Também trocado o
   `1000 if opp.hand else 0` do alvo-personagem em `don_needed_for_attack`
   pela mesma conta real (antes só o alvo-líder usava isso).
4. **Stage nunca chegava ao motor** — confirmado no `PlayerState.cs`
   decompilado: o jogo tem `Lgo_MyStage` dedicado, nunca lido pelo plugin
   (só `Lgo_MyDeploy`, que é só personagem). O Fullalead (stage do próprio
   bot) ficava em campo a partida toda sem nunca ser oferecido pro
   Activate:Main. Fix: `dto.stage` em `GameStateDto.cs`/`GameStateBuilder.cs`
   (lê `Lgo_MyStage`) + `PlayerDto.stage`/`gs.field_stage` em `server.py`.
   Validado end-to-end em Python e via Turn Planner real (Fullalead passou
   a ser oferecido, score 154). **DLL recompilada e copiada nesta sessão**
   — qualquer sessão nova que reabrir o jogo sem essa DLL não tem o fix.
5. **Bug pré-existente achado incidentalmente**: `_pay_costs` tinha uma
   branch `ko_own_character` DUPLICADA e quebrada (variável `p` indefinida,
   claramente colada de `_should_activate_main` por engano) — código morto
   até os fixes acima mudarem o scoring e o Turn Planner escolher, pela
   primeira vez num seed fixo do `smoke_test_broad.py`, uma ação que
   passava por ali. Removida a duplicata (a branch correta já existia logo
   depois, usando `self.me`).
6. **`debuff_power` (target `opp_leader_or_character`) escolhia por
   `board_value` puro, incluindo personagem JÁ RESTADO** (partida 2: Van
   Augur debuffou -3000 no St. Marcus Mars bem depois dele já ter atacado
   — efeito `this_turn` desperdiçado). Fix: prioriza ativo (não restado);
   só cai pra qualquer um se não sobrar opção ativa.
7. **Busca (`add_to_hand`) escolhia por `board_value` puro** (poder+keyword,
   sem contexto) em vez de `avaliar_carta` (situacional: custo jogável
   agora, fase, flags de efeito, postura) — mesmo padrão usado em ~12
   lugares do `_execute_step`, mas só troquei este (Laffitte/Shiryu-search)
   por ser o caso concreto reportado; os outros 11 ficam pendentes (ver
   abaixo — pra "sacrifício" a lógica se inverte, quer o MENOR valor).
8. **Guarda de campo cheio ausente no caminho principal de jogar carta**:
   a execução real (`main_phase`, ~linha 7290) sempre KO a pior carta do
   campo ao jogar um Character com campo cheio, SEM comparar se a nova é
   melhor — só um caminho secundário (efeito trigger-driven, GRUPO 2) tinha
   essa comparação. Causava troca Doc Q→Doc Q→Van Augur repetida no mesmo
   turno (visto em partida real: `Trash Doc Q / Deploy Doc Q / Trash Doc Q
   / Deploy Van Augur` 3x seguidas, turno de 9 DON). Fix: `_score_play_action`
   desqualifica (-999) jogar um Character quando o campo já tem 5 e ele não
   supera o pior lá, ANTES do DON ser gasto.

### Pendências (achadas, não corrigidas)
- **Shiryu (OP16-108) nunca jogado com 3 cópias na mão e DON de sobra**:
  causa raiz é o PARSER, não o scoring — `[On Play] trash 1: add card do
  trash pro topo da vida face-up` não está em `card_effects_db.json` (só o
  `[Trigger] draw 2` foi parseado). `card_analysis_db.json` (flags) está
  correto (`gains_life`, etc.), então a carta não é totalmente ignorada,
  mas perde o bônus de `_score_play_action` que depende de
  `'on_play' in effects`. Corrigir isso é trabalho de PARSER (workflow
  próprio: snapshot → fix → `diff_parser.py` PERDEU=0 → gerar_dbs →
  re-snapshot), não fiz nesta sessão.
- **9 outros lugares com `max(..., key=board_value)`** no `_execute_step`
  (K.O. por efeito, roubo, etc.) — mesmo padrão do achado #7, revisar um a
  um se faz sentido trocar pra `avaliar_carta` (contexto muda o sinal em
  alguns, ex: escolha de sacrifício quer o MENOR valor, não o maior).
- **Coordenação de múltiplos atacantes no mesmo alvo**: investigado e
  descartado como bug — usuário confirmou que atacar 2x o mesmo alvo pode
  ser drenar recurso de defesa do oponente de propósito (o bot não sabe de
  antemão se o 2º ataque vai passar de graça ou não). Sem ação.

### Validação
`smoke_test.py` (100%) e `smoke_test_broad.py` (40/40 sem exceção) rodados
depois de CADA fix acima; usei `git stash` pra comparar com baseline
quando a causa de uma falha não era óbvia (achado #5 veio assim).
`audit_replay.py` está quebrado no baseline por motivo não relacionado
(`_suppress_replay_log`/`decision_log` ausentes no `OPTCGMatch` construído
por esse script) — confirmado via stash, não é regressão desta sessão, não
investigado.

Logs das 2 partidas reais (SoloVSelf, mesma decklist nos dois lados):
`CombatLogs/2026-07-07T16.41.20.log` (antes dos fixes 1-3) e
`2026-07-07T18.27.45.log` (com os fixes 1-4, gerou os achados 5-8). Nas
duas o bot perdeu pra recursão Five Elders/Ethanbaron do oponente — não
investigado ainda (deck/estratégia de longo prazo, não bug pontual).

### Operacional
Server precisa reiniciar (.py mudou nos itens 1-3 e 5-8). DLL só muda pro
item 4 (Stage) — já recompilada e copiada pro BepInEx nesta sessão; se
abrir o jogo numa sessão nova sem rodar `dotnet build` de novo, o Stage
volta a ficar invisível pro motor.

---

## 2026-07-06 (98) - Claude

### Fecha o trabalho do Codex (bloco 97): piso prematuro em `live_attack_power`

Retomei a sessão onde o Codex ficou sem uso diário — ele já tinha commitado
o `powerAtk` end-to-end (97/8d01686) e deixado uncommitted: a correção do
alvo do copy-power da Devon (`EffectExecutor` usa `choose_highest_effective_power`
em vez de `choose_highest_board_value`; `order_target_candidates` prioriza
copy-power antes das zonas genéricas) e testes de regressão no
`smoke_test.py`. `python smoke_test.py` mostrava **1 teste falhando**:
exatamente o caso relatado pelo usuário (Doc Q -2000 vivo atacando Krieg
9000 com 9 DON — matematicamente perdido, mas o engine liberava a ação).

**Causa raiz**: `live_attack_power` aplicava `max(0, ...)` no poder vivo
**antes** de somar o DON que ainda seria anexado. Com Doc Q em -2000 e
`don_disp=9`, o cálculo virava `max(0,-2000) + 9000 = 9000` (empata com o
alvo — parece válido), quando o real é `-2000 + 9000 = 7000` (perde). O
log da partida confirma: com 9 DON anexados o combate real saiu **7000**,
nunca 9000 — o próprio `CardPower` do jogo não pisa em zero (achado do
Codex). Fix: removido o piso de `live_attack_power`; o piso só faz sentido
depois de somar TODO o DON (já anexado + o que ainda será), e os
consumidores (`score_attack_target`, `don_needed_for_attack`) já fazem essa
soma por cima — pisar antes é que causava a subestimação do déficit.

Validação: `python smoke_test.py` → TODOS OS TESTES PASSARAM (era só esse).
3 simulações completas sem regressão. Teste end-to-end via `/decide` e
`/choose_target` replicando a cena exata da partida (Doc Q/Devon com -2000
vivo, Krieg 9000 e Buggy 4000 em campo): o engine não gera mais o ataque
perdido (topo da lista vira ataque de líder com DON, score 15) e a Devon
escolhe Krieg (maior poder) antes de Buggy no copy-power. Plugin
recompilado (dll já tinha o `powerAtk` do commit anterior, só Python mudou
nesta rodada — ainda assim recompilei para garantir dll == fonte commitada).

Reiniciar o server antes da próxima partida (só `.py` mudou de fato).

---

## 2026-07-06 (97) - Codex

### Fix: engine consome `powerAtk` do jogo para ataque com debuff/passiva ao atacar

Contexto: depois do bloco 96, o plugin C# ja calculava `powerAtk` via
`CardPower(..., attacking=true)`, mas o server Python ainda ignorava esse
campo. Resultado provavel: o engine decidia ataques usando `dto.power` normal
e podia atacar como se nao existisse debuff/passiva que so aparece no momento
do ataque (caso observado: ataques sem considerar -2000 do lider/efeito opp).

Mudancas:
- `BOT/engine_server/server.py`: `CardDto` agora aceita `powerAtk`; `_make`
  guarda `_attack_power_override` na instancia da carta sem trocar
  `card.data.power` (fora do ataque continua usando `dto.power`).
- `scriptis_da_ia/optcg_engine/decision_engine.py`: novo `live_attack_power`
  usa `_attack_power_override + power_buff + DON`; `attack_time_power` parte
  desse valor e so depois projeta `[When Attacking]`.
- `Card.__deepcopy__` preserva `_db_base_power` e `_attack_power_override`
  para o Turn Planner nao perder os poderes vivos ao clonar estados.
- Potencial ofensivo, lethal planner e logs de ataque relevantes passaram a
  usar `attack_time_power`/`live_attack_power` em vez de `effective_power(True)`
  direto.

Validacao curta (sem simulacao longa):
- `python -m py_compile BOT\engine_server\server.py scriptis_da_ia\optcg_engine\decision_engine.py scriptis_da_ia\optcg_engine\sim_bridge.py`
- teste inline: atacante com `powerAtk=3000` + 1 DON vira 4000 e
  `don_needed_for_attack` pede +1 DON contra lider 5000.

Operacional: por mexer em `.py`, reiniciar o server antes do proximo teste
in-game. Por mexer no DTO/plugin C#, recompilar/recarregar a DLL se essas
mudancas ainda nao tiverem sido compiladas no build atual.

---

## 2026-07-06 (96) - Claude

### Diagnostico: partida das 10:29 rodou com SERVER ANTIGO

A partida CombatLogs/2026-07-06T10.29.31.log mostrou a reacao do Teach
disparando num caso que o codigo do bloco 95 (commit 09:55) bloqueia
(redirect p/ Van Augur com ganho liquido -2 << 25). A dll era nova (09:52)
mas o processo Python do server nao foi reiniciado. LEMBRETE OPERACIONAL:
apos mudanca em .py, Ctrl+C no server + rodar de novo; apos mudanca na dll,
fechar e reabrir o jogo.

Achado da analise: Krieg OP15-008 tem 9000 de BASE (custo 8) e o -2000 nos
nossos personagens vem do [Activate: Main] dele — o engine novo ve ambos ao
vivo via dto.power. Log do plugin agora imprime o don anexado no ataque
("[Bot] attack: X -> Y (don N)") para fechar auditorias como essa.

---

## 2026-07-06 (95) - Claude

### Fixes da 6ª rodada (partida CombatLogs/2026-07-06T09.48.13.log)

1. **"Turno perdido" com 4+ DON em pe (turnos de 5 e 7 don)** — causa: apos
   ativar o Laffitte, o engine REOFERECIA o mesmo activate como acao top
   (nao sabia que ele restou / ja usou a acao); o jogo recusava em silencio
   e o guarda de 3 repeticoes ENCERRAVA o turno (sem ataque do lider, DON
   parado). Fix em 2 camadas no gerador de activate:
   - fonte RESTADA nao gera activate (parser nem sempre captura rest_self);
   - `actionUsed` novo no DTO (lb_ActionsUsed do jogo) → `_am_used_turn`
     do engine, bloqueando QUALQUER re-activate no turno (com ou sem
     once_per_turn — o estado do jogo e a verdade; loops da Devon idem).
2. **Reacao do lider (Teach) sempre no 1º ataque** — a reacao e 1x/turno;
   agora `resolve_reaction` segura quando ainda vem atacante MAIOR
   (personagem ativo do opp ou lider em pe) e o ganho atual e marginal
   (< 2x o custo da carta). Ganho alto (ex: Doc Q com on-KO cheio) continua
   disparando na hora. Validado: Jango 2000 com Krieg 9000 por vir → False;
   Krieg 9000 atual → True.

Plugin recompilado (actionUsed no CardDto), 3 simulacoes OK.
Reabrir o jogo (dll nova) + reiniciar o server.

---

## 2026-07-06 (94) - Claude

### Fixes da 5ª rodada in-game (partida CombatLogs/2026-07-06T09.12.31.log)

4 observacoes do usuario, 4 fixes (+1 causa raiz achada):

1. **Laffitte de novo sem search em turno de 3 DON**: bonus +60 no
   _score_activate_main quando ativar nao trava o plano
   (don_available >= custo_don + 2) — activate 215 vence deploys (~125-166).
2. **Passou o turno com 1 DON ocioso e atacou 5000 seco**: margem parcial
   REABILITADA no don_needed_for_attack (o tudo-ou-nada do bloco 88 caiu):
   don_livre ja exclui plano+reserva, entao e DON ocioso — anexar e pressao
   gratis (força mais counter do oponente). CAUSA RAIZ junto:
   `opp_counter_potential` era estimativa estatistica por tamanho de mao
   (mao de 2 Kobys counter 2000 → devolvia 0!); agora soma REAL dos
   counters da mao do opp (objetos Card existem na sim e no SoloVSelf;
   docstring anota o caso futuro de mao oculta vs humano).
3. **Trigger do Sanjuan Wolf desperdicado**: resolve_trigger_choice
   reescrito — NAO usar trigger = carta vai pra MAO (valor garantido).
   draw seco/desconhecido → False; activate_main_effect (trigga o on-KO,
   caso Sanjuan/Vasco) → so se on_ko_value >= 25 no campo atual; ko/bounce/
   play/give_don/rest/debuff → True. Devon continua True (play_from_trash).
   Server passa opp_gs para o resolve.
4. **Engine cego ao -2000 do campo no copy-power**: modificadores vivos do
   atacante persistem apos set_base_power. Server guarda
   `card._db_base_power` (poder de banco) quando o vivo difere;
   attack_time_power aplica mod = vivo - banco na base copiada (Devon viva
   1000/banco 3000 copiando 5000 → 3000, nao 5000). Krieg OP15-001 tem
   opp_turn debuff_power 2000 all_opp_characters (confirmado no effects_db).

Validado: attach parcial de 1 DON ocioso, activate 215 primeiro no turno
de 3 DON, triggers Sanjuan False/Vasco True/Devon True, copy c/ debuff
3000. 3 simulacoes OK (1 vitoria do lado A). So Python — reiniciar server.

---

## 2026-07-04 (93) - Claude

### Fixes da 4ª rodada in-game: on-KO com FILTROS reais + search antes de deploy

Duas observacoes do usuario na partida das 18:55:

1. **Redirect escolheu Doc Q com o efeito MORTO**: o on-KO dele so KO-za
   custo <= 1 e o oponente nao tinha nenhum (morreu por um draw seco; o
   Vasco Shot, cujo rest custo <= 6 tinha alvo, era o certo). Fix:
   `on_ko_value` agora aplica os FILTROS dos steps (cost_lte/power_lte/
   rested_only/filter_type via `_step_matching_targets`) contra o campo
   real do oponente — KO sem alvo vale 0. Rest de personagem subiu de 15
   para 25 (nega ataque/bloqueio = tempo real). Validado na cena real:
   Vasco vem antes de Doc Q; com um custo 1 no campo (Otama), Doc Q volta
   a frente.
2. **Laffitte de novo sem ativar o search**: activate (135 pos-descontos)
   perdia para deploys baratos (135.5-150.5) e o DON acabava. Base de
   vantagem de carta em _score_activate_main: 120 → 170 (search PRIMEIRO e
   estritamente melhor: filtra o deck antes de decidir os deploys).
   Validado: activate 155 vira a 1ª acao do turno.

So Python — reiniciar o server. Simulacoes OK (ate uma vitoria do lado A,
variancia normal).

---

## 2026-07-04 (92) - Claude

### Varredura de consciencia de efeito no engine (pedido do usuario)

Auditoria dos pontos de decisao: char_value_score, should_use_blocker,
avaliar_carta e o branch de personagem do score_attack_target JA eram
effect-aware. 3 pontos cegos corrigidos:

1. **Alvo do copy-power (Devon OP16-104)**: `/choose_target` agora passa
   `actorCode` ao `order_target_candidates`; se o ator tem when_attacking
   `set_base_power` de `selected_opp_character`, opp_board ordena por
   MAIOR PODER (copiar o maior), nao por valor generico.
2. **Remocao de personagem do oponente**: opp_board ordena por
   `char_value_score - on_ko_value` — KO-zar personagem com on-KO rico
   presenteia o efeito ao oponente (o Doc Q DELES cai pro fim da fila).
3. **Pitch de counter** (`select_counter_cards`): empate no valor de
   counter desempata por `avaliar_carta` — nao joga fora carta com efeito
   bom junto com o counter (validado: pitchou Van Augur 135, guardou
   Shiryu 195).

Pontos cegos CONHECIDOS e nao corrigidos (baixo impacto, proxima leva):
- `should_use_counter` nao conta eventos [Counter] da mao (so card.counter);
- fallbacks raros de prompt usam choose_highest_board_value (so keywords).

So Python — reiniciar o server antes da proxima partida.

---

## 2026-07-04 (91) - Claude

### Redirect CASO A CASO por ganho liquido (refina o bloco 90)

Usuario corrigiu a prioridade fixa do bloco 90 ("sobrevivente primeiro"):
as vezes QUEREMOS o on-KO (Doc Q) mesmo com sobrevivente disponivel. Agora
cada opcao e pontuada pelo ganho liquido no campo atual e comparada:
- `redirect_option_value(card, atk, opp, engine)`: sobrevive = 0;
  morre = on_ko_value - char_value_score (Doc Q = +55 → vem ANTES de
  sobrevivente; sem chars do oponente o on-KO de KO vale 0 e ele cai).
- `life_redirect_cost(life)`: 15/25/45/90 p/ vida 4+/3/2/1 — o lider
  compete de igual (golpe em personagem → lider pode ser o melhor escape).
- `resolve_reaction`: reage se max(opcoes) + [valor salvo no alvo original]
  >= 25 (custo de 1 carta). Vida 4 + Doc Q → reage (troca paga); so
  sobrevivente → precisa vida <= 3; guardas de mao mantidas.
- `order_target_candidates` usa a MESMA conta (fonte unica) — nada de
  grupos fixos.

Testes: Doc Q antes de sobrevivente; lider antes de sacrificio seco; sem
chars do opp o sobrevivente volta a frente; reage com vida cheia so quando
a troca paga. 2 simulacoes OK. So Python — reiniciar o server (dll do 90
continua valida).

---

## 2026-07-04 (90) - Claude

### Redirect do Teach EFFECT-AWARE (regra do usuario)

O engine agora sabe o que as cartas fazem ao decidir usar e escolher o alvo
do redirect:

- Nova `on_ko_value(code, opp)` no decision_engine: valor dos efeitos
  [On K.O.] (ko 30/un, draw 15, rest 15, play 30...) — Doc Q OP16-109 vale
  75 (2 KOs + draw), Laffitte 0.
- `resolve_reaction(..., defender_uid)`: alem de sobrevivente/sacrificio,
  reage quando (a) o alvo original e um personagem NOSSO valioso
  (board_value >= 4) prestes a morrer — redireciona para o LIDER, 1 vida
  salva o personagem; (b) existe sacrificio barato com on-KO rico
  (on_ko_value >= 20) — vale ate vida 3.
- `order_target_candidates` com contexto de ataque prioriza:
  1. sobrevivente (maior poder), 2. sacrificio com on-KO rico,
  3. o proprio LIDER quando o alvo original e personagem nosso (vida > 1),
  4. sacrificio seco (valor descontado do on-KO). Alvo original sempre
  por ultimo.
- Plumbing: /defense reaction agora recebe `defenderId` (plugin envia
  UidOf(go_Defender)); EngineClient.Defense ganhou o parametro.

Testes: Doc Q escolhido antes do lider, lider antes de sacrificio seco,
sobrevivente sempre primeiro, alvo original sempre ultimo; reacao dispara
p/ salvar Shiryu 8000 e p/ trocar Doc Q com vida 3. 2 simulacoes OK,
plugin recompilado. Falta teste in-game (reabrir jogo + reiniciar server).

---

## 2026-07-04 (89) - Claude

### Fixes da 3ª rodada in-game (partida CombatLogs/2026-07-04T12.49.05.log)

5 observacoes do usuario + 2 bugs achados na investigacao:

1. **[Activate: Main] agora executa** (Laffitte OP09-095 search nunca rodava):
   o server excluia 'activate' dos allowed_types e o bridge pulava — o log
   mostrava `(105.0, 'activate')` sendo ignorado toda rodada. Novo
   `TryActivate` no plugin (clique na carta em campo → CardAction idx, mesma
   busca de acao do fluxo de evento, extraida em `FindActivatableMainIndex`).
2. **BUG GRAVE: sim_bridge lia `_effects_db[code]['trigger']` sem o nivel
   `'effects'`** — steps sempre {} → o bot NUNCA usava trigger de vida
   (todos os `[DEF] trigger -> False` dos logs) e `get_card_on_play_steps`
   sempre []. Corrigido usando `get_card_effects` (que resolve o nesting).
3. **`attack_time_power`**: poder no momento do ataque inclui buffs proprios
   de [When Attacking] (buff_power self e set_base_power copiando personagem
   do oponente — Catarina Devon OP16-104 3000 agora vale o maior char do opp
   no score e no calculo de DON). Usado em score_attack_target e
   don_needed_for_attack.
4. **Margem de counter no lider = PROVAVEL (cap 2000), tudo-ou-nada**: o
   potencial cheio afundava DON demais; margem parcial e DON queimado (o
   oponente cobre a diferenca) — ou cobre o provavel inteiro ou vai seco.
5. **resolve_reaction criterioso** (Teach pagava carta toda rodada e ficou
   de mao vazia): nao usa mais should_use_counter (exigia counter numerico;
   redirect paga carta qualquer). Regras: ataque precisa ganhar; mao >= 2
   (salvo vida 1); redirect para SOBREVIVENTE so com vida <= 3; sacrificio
   barato (board_value <= 3) so com vida <= 2. Sem alvo viavel → nao paga.
6. **Preservacao de mao**: plays com mao <= 3 levam penalidade crescente
   (-30/-60/-90) — deixa carta para counter/custo de reacao.
7. **Guarda de loop no BotDriver**: mesma acao 3x seguidas sem mudar o estado
   (jogo recusando em silencio; turno 7 do log repetiu `(20.0, 'attack')`
   ~20x) → end turn.

Validacao: unit tests de attack_time_power (Devon 3000 → 12000 com Newgate
no campo), trigger OP16-104 → True, /decide devolve activate p/ Laffitte,
5 cenarios de resolve_reaction OK, 3 simulacoes completas sem regressao,
plugin recompilado (0 erros). Falta teste in-game.

---

## 2026-07-04 (88) - Claude

### Margem de counter virou LUXO — ataque "seco" de pressao (regra do usuario)

Refinamento do item 3 do bloco 87. Atacar 5000 vs 5000 SEM don e jogada
legitima: forca o oponente a escolher entre gastar counter/blocker ou perder
a carta/tomar dano. `don_needed_for_attack` agora separa duas parcelas:
- **Deficit base** (alvo - poder): obrigatorio, sempre anexado.
- **Margem de counter**: so paga com DON LIVRE do plano do turno —
  `don_available - jogadas que o engine ainda pretende fazer (plays com
  score >= 0, em ordem, enquanto o don alcanca) - reserva de defesa
  (_don_reserve_for_defense) - o proprio deficit base`.

`sim_bridge.don_for_attack(gs, opp, action, match=...)` calcula o don livre
(match da acesso ao plano); `/decide` passa o match. Simulacao continua com
don_livre=None (comportamento identico ao anterior — verificado).

Cenarios validados (TestClient + unit): plano cheio → so o base (probe seco
no 5000v5000); don ocioso → base + margem; margem 0 quando o oponente nao
tem counter potencial (correto, nao e bug). 3 simulacoes completas OK.
So Python — dll do bloco 87 continua valida, mas reiniciar o server.

---

## 2026-07-04 (87) - Claude

### Fixes da 2ª rodada de teste in-game (partida CombatLogs/2026-07-04T11.58.22.log)

Teste in-game do bloco 86 validou: redirect do Teach 3x sem alvo original,
personagens atacando, attach de DON pre-ataque funcionando (2/2 na Devon →
9000 matou Arlong), evento com custo OK. 4 problemas novos corrigidos:

1. **Engine cego a buffs/debuffs** (Devon -2000 do Krieg): o server usava o
   poder do BANCO. Agora GameStateBuilder envia `CardPower(go, false, true)`
   (poder vivo, sem When Attacking, sem DON — engine soma DON sozinho) e o
   `_make` troca o CardData da instancia via `dataclasses.replace`.
   **CUIDADO (bug ja cometido e corrigido aqui): NUNCA passar poder alterado
   no dict para `_make_card` — o `_CARD_DATA_CACHE` e por codigo e o valor
   envenena todas as copias futuras da carta, inclusive nas simulacoes.**
2. **Lider parado em turno de 5 DON**: postura DEFENSIVE (-80) + risco de
   trigger deixavam o ataque de lider validado com score -4 → bot passava o
   turno sem atacar. Piso `max(score, 15)` p/ ataque de LIDER (ele resta de
   qualquer forma, nao expoe personagem).
3. **Teach 5000 vs Arlong 5000 falhou por counter de 1000**:
   `don_needed_for_attack` agora poe margem de 1000 em alvos PERSONAGEM se o
   oponente tem mao (no lider ja usava opp_counter_potential).
4. **DON desperdicado no turno 1**: o `max(2, turn)` do `_dto_to_gs` fazia o
   engine gerar ataque no turno 1; o plugin anexava o DON e SO ENTAO recusava
   o ataque. Removido o hack (turno real; engine ja barra ataque em turn 1) e
   o attach movido para DENTRO do TryAttack, depois de todas as validacoes.

Validacao: TestClient (turno 1 → end_turn; Devon debufada nao ataca o Gin;
donToAttach=2 com margem; lider defensivo ataca com score 15; cache do
CardData intacto apos request com debuff), 3 simulacoes completas OK, plugin
recompilado (0 erros). Falta: proxima partida in-game para confirmar.

---

## 2026-07-04 (86) - Claude

### As 5 pendencias dos blocos 84/85 implementadas (falta testar in-game)

**Itens 4+5 (so lider ataca / ataques perdedores) — mesma raiz dupla:**
1. `/decide` devolvia `end_turn` quando a acao top do engine era um tipo que o
   plugin nao executa (`attach_don`/`activate`) → turno morria antes dos
   personagens atacarem. Fix: `choose_action(allowed_types=...)` no sim_bridge
   pula tipos nao-executaveis e pega a proxima acao de score >= 0 (ordem de
   preferencia continua 100% do engine).
2. O engine aprovava ataque contando com DON (`passa_com_don` +
   `_attach_don_for_attack` na simulacao), mas o bot declarava o ataque SEM
   anexar → Teach 5000 vs Jozu 7000 falhava. Fix: extraida
   `don_needed_for_attack()` (pura, decision_engine) usada pela simulacao e
   pelo `/decide`, que agora responde `donToAttach`; o plugin anexa via
   `AttachDonToCard` (publico no GLS; lider = iDeployIdx -1; dispara
   `CheckForAttachDonAction` como o fluxo humano). Acao `attach_don`
   (ligar keyword/efeito [DON!! xN]) tambem suportada. DTO ganhou
   `donAttached` por carta (lgo_AttachedDon.Count) para o engine ver DON ja
   anexado.

**Itens 2+3 (zonas trash/top_deck nos candidatos):**
- `CollectTargetCandidates` agora inclui `own_trash`/`opp_trash`
  (Lgo_MyTrash) e `top_deck` (lgo_TopDeck privado, via reflection); cada
  candidato leva `code` para o engine valorar cartas fora do DTO.
- `order_target_candidates`: top_deck = melhor carta primeiro (search),
  own_trash = melhor primeiro (recuperacao), opp_trash = melhor primeiro.
- Confirmacao de selecao agora clica o botao de finalize CERTO ofertado
  (le go_ChoiceButton1..4 ativos): `FinalizeTopDeck` → `ConfirmRevealedCard`
  → `SelectTargets` (fallback = comportamento antigo).

**Item 1 (redirect do Teach com alvo ruim/nulo):**
- `/choose_target` ganhou `attackerPower`/`defenderId`; o BotDriver os envia
  quando um efeito resolve durante estados Attack_*. Com contexto de ataque,
  `order_target_candidates`: alvo original SEMPRE por ultimo (redirect pra ele
  = no-op pago), personagem que sobrevive (poder > atacante) primeiro, senao
  sacrificio mais barato. Testado: sobrevivente 8000 vs golpe 6000 vem
  primeiro; sem sobrevivente, o 0-power vem primeiro; defensor sempre ultimo.

**Validacao:** unit tests via TestClient (decide/choose_target/health OK),
don_needed_for_attack (2 DON p/ 5000 vs 7000; -999 com DON insuficiente),
3 partidas simuladas completas (regressao do refactor OK), plugin compilado
(`dotnet build` 0 erros, dll copiada). **Falta: reabrir o jogo e testar
in-game** — personagens atacando, DON anexado pre-ataque, search do
OP09-096 escolhendo carta, Shiryu pegando do trash, redirect do Teach.

---

## 2026-07-04 (85) - Claude

### Mais pendencias observadas em partidas (2ª e 3ª partidas completas)

Partidas rodando de ponta a ponta com estabilidade (logs em CombatLogs/). Novas observacoes do usuario, somando as do bloco 84:

3. **Search do "My Era...Begins!!" (OP09-096) sem escolha**: o evento resolve
   mas o bot nao escolhe nenhuma carta na tela de search ("look at top X,
   reveal and add"). As cartas reveladas ficam numa zona propria
   (`lgo_TopDeck` no GLS) que NAO esta no `CollectTargetCandidates` — mesma
   familia do bug do trash (bloco 84 item 2). Adicionar zonas top_deck/trash
   aos candidatos + botoes de finalize (`FinalizeTopDeck`/`ConfirmRevealedCard`).

4. **Bot so ataca com o lider (quase nunca com personagens)**: personagens
   raramente atacam (Shiryu atacou 1x na 1ª partida, mas o padrao e so leader).
   Investigar: `bSummonSick` pode nao estar sendo limpo na leitura do DTO
   (justPlayed sempre true?) ou o engine esta descartando ataques de chars.

5. **Bot ataca com poder menor** (ex: Teach 5000 vs Jozu 7000 → Attack Fails,
   turno desperdicado): score de ataque do engine aceita ataques perdidos.
   Revisar `score_attack_target` — ataque que falha sem forcar counter/blocker
   do oponente nao deveria ter score positivo.

---

## 2026-07-04 (84) - Claude

### 🎉 PRIMEIRA PARTIDA COMPLETA (Solo vs Self, bot 100% automatico)

Partida inteira sem intervencao no lado do bot — log salvo em
`CombatLogs/2026-07-04T02.30.14.log` (bot perdeu no turno 5, mas jogou tudo):
- Mulligan, draw/don, deploys, EVENTS resolvendo (custo pago certo)
- Ataques com alvo do engine; defesa: counters (2x Catarina Devon fizeram o
  Ace de 6000 falhar contra 8000!), triggers, reacao do lider Teach com
  redirect de alvo, deploy pos-combate — tudo decidido pelo engine

**2 bugs observados na partida (proxima sessao):**
1. **Reacao do Teach com alvo ruim/nulo**: linha 207 do log — redirecionou o
   ataque para O PROPRIO TEACH (alvo original; pagou 1 carta por nada). Linha
   405: redirecionou para Doc Q [0 power] que morreu (deu 1 draw pelo on-KO,
   mas duvidoso). A decisao de USAR vem do should_use_counter, ok — mas o
   ALVO do redirect precisa de logica propria no engine (redirecionar so se
   existir personagem que sobrevive ao ataque ou que valha o sacrificio;
   nunca redirecionar para o proprio alvo original).
2. **Shiryu (OP16-108) on-play incompleto**: trashou da mao (custo ok) mas a
   parte de escolher carta DO TRASH nao aconteceu — `CollectTargetCandidates`
   nao inclui a zona TRASH (nem deck/vida). Adicionar own_trash/opp_trash
   como zonas de candidato + ordenacao no order_target_candidates.

---

## 2026-07-04 (83) - Claude

### docs: BOT/README.md com a arquitetura em camadas

Criado `BOT/README.md`: diagrama Plugin C# → server.py → sim_bridge.py → decision_engine.py (regra do motor unico), como rodar, como recompilar, tabela de endpoints, cobertura atual e pendencias.

---

## 2026-07-04 (82) - Claude

### Hook pre-commit: regras de memoria impressas em todo commit

Novo `scripts/hooks/pre-commit` (instalado via `setup-git-hooks.sh`, igual ao pre-push): imprime `memory/MEMORY.md` + as 3 regras-chave (um motor so / objetivo do bot / HANDOFF antes do push) na saida de TODO `git commit`. Para sessoes de IA o texto entra no resultado do comando — leitura forcada no momento do commit. Nao bloqueia (lembrete, nao gate).

Lembrete: em maquina/clone novo rodar `sh scripts/setup-git-hooks.sh`.

---

## 2026-07-04 (81) - Claude

### refactor: decisoes movidas do plugin/server para sim_bridge (regra dos dois motores)

Usuario lembrou da regra ANTES do teste — auditoria achou 2 violacoes introduzidas nas sessoes 75-80:
1. Plugin C# decidia "usa efeito opcional se mao >= 2" (BotDriver)
2. server.py continha heuristicas (selecao de counters, ordenacao de alvos)

**Novas funcoes no sim_bridge.py (unico lugar com logica de decisao):**
- `select_counter_cards(gs, atk, def) -> [uids]` — politica do use_counter
- `resolve_reaction(gs, opp, atk, def) -> bool` — efeito com custo durante ataque
- `resolve_optional_effect(gs, opp) -> bool` — efeito com custo no proprio turno (mao >= 2 E pior carta com avaliar_carta <= 60)
- `order_target_candidates(gs, opp, candidates) -> [uids]` — ordenacao por zona

server.py agora so delega (transporte puro). Plugin: downside no proprio turno chama `/defense phase=optional` (zero logica em C#).

Testes das 4 funcoes OK. Memoria `feedback_dois_motores.md` atualizada com o caso.

---

## 2026-07-04 (80) - Claude

### Defesa FUNCIONANDO in-game + reacao via engine + deploy swap

Usuario confirmou: bot reage aos ataques (blocker/counter/trigger/prompt do Teach OK). Dois refinamentos pedidos:

**1. Reacao do lider (Teach) em TODO ataque** — a heuristica "mao >= 2 → usa" era do plugin (paliativo). Agora: downside offer durante estados de ataque (`Attack_WaitOnBlocker/BeforeBlocker/WaitOnCounters`) → `POST /defense phase=reaction` → `engine.should_use_counter(atkPower, defPower)` decide (so gasta carta se o ataque e serio para a vida atual). Downside no proprio turno (pos-play) mantem heuristica mao >= 2.

**2. Deploy com campo cheio (5 chars)** — estado `Action_SelectingDeploySwap` ("Select Character to Replace") nao era tratado → freeze. Agora: engine ordena o proprio campo por menor valor (`/choose_target` zona own_board), `DeploySwap(go, false)` substitui o pior personagem. Sem candidato → Cancel.

Recompilado; falta reabrir o jogo e testar.

---

## 2026-07-04 (79) - Claude

### fix: actor V3 null — causa raiz dos travamentos em prompts de efeito

Heartbeat revelou: em TODOS os prompts pendentes, `aca=True mine=False actor=-` — `acaActive.goActor` e **null em acoes V3** (a maioria das cartas modernas). `PendingActionIsMine` retornava false e os handlers silenciavam.

**Fix**: usar `acaActive.ActorObject()` (metodo publico que resolve os dois estilos: old-style usa goActor; V3 busca `FindCardByUniqueDeckID(iActorID)`).

**Melhorias no HandlePendingAction:**
- `RemainingV3Targets(gls)` via `RemainingTargetsToSelect` (private): se 0 alvos faltando (ex: "Choose 0 Friendly Targets") → confirma direto via `ChoiceButtonClicked(SelectTargets)` → `V3NextStep(acaActive)` (todos os botoes Select*/ConfirmInfiniteTargets roteiam para V3NextStep)
- Rastreia `iActionStep`: novo step do mesmo acaActive → refaz a ordem de candidatos
- Esgotou candidatos: confirma selecao parcial V3 uma vez; ainda travado → Cancel

Evento agora resolve e vai pro trash ✓ (confirmado in-game pelo usuario). Teach: o prompt acontece com acaActive setado durante Attack_WaitOnCounters — com o actor fix o handler agora assume.

---

## 2026-07-04 (78) - Claude

### fix grave: bot pagava DON de EVENT sem efeito + heartbeat de debug

Usuario reportou: bot "jogou" 2x o evento My Era...Begins!! (OP09-096) — DON pago, sem log no jogo, sem carta no trash, carta continuou na mao.

**Causa**: `TryPlay` clicava `Deploy` para qualquer carta. `Deploy()` roda `TapDon(custo)` INCONDICIONALMENTE e depois so tem branch para Character/Stage — para EVENT: paga o DON e nao faz nada.

**Fluxo correto de EVENT** (decompilado): clique na carta → `EventFindPossibleActions` seta `go_PendingChoice` e adiciona botoes **CardAction** (um por acao, extra = indice) → clique no CardAction → `ActivateCardAction(idx)` → evento vira acaActive, custo pago pelo pipeline da acao.

**Fix**: `TryPlay` agora detecta `cardDef.cardType == CardType.Event` e clica `ChoiceButtonClicked(CardAction, idx)` com o indice da primeira acao ativavel (replica a busca do EventFindPossibleActions: V3 `proc.ActivateMain && CanActivateAction(i)` primeiro, old-style `actionTrigger.ActivateMain` depois). Sem acao ativavel → Cancel.

**Debug**: heartbeat no BotDriver loga estado do jogo a cada 3s (state/turn/action/aca/downside/mine/actor) quando muda — para diagnosticar o travamento do prompt do Teach que continua silencioso (handlers novos na dll confirmados, mas nada logado; proximo teste com heartbeat vai revelar).

Teach: efeito e ANTES do dano (reacao ao ataque), nao depois — corrigido o entendimento.

---

## 2026-07-04 (77) - Claude

### fix: prompt "Select 1 Cards to Trash" era downside offer (bOfferingDownside)

Bot travou de novo no efeito do lider Teach. Log do BepInEx: silencio apos "no blocker" — o handler de acaActive nem rodava, porque o prompt e uma **oferta de downside cost** (`bOfferingDownside = true`, linha 30794 do GLS): efeito opcional com custo (trash 1 carta) mostra botoes **Cancel / UseOnPlay** e IGNORA cliques em cartas ate decidir. Meu branch excluia exatamente esse caso.

Fix no `BotDriver`: quando `acaActive != null && bOfferingDownside && efeito e do bot` → decide usar (mao >= 2 cartas → `UseOnPlay`; V3 → `UseV3OnPlay`) ou `Cancel`. Depois do UseOnPlay o jogo zera bOfferingDownside e a selecao do custo (trash) cai no `HandlePendingAction` normal (engine escolhe a pior carta).

Heuristica MVP do "usar ou nao": mao >= 2 cartas. Refinar depois com decisao do engine se necessario.

---

## 2026-07-04 (76) - Claude

### Teste de defesa in-game + 2 fixes: crash do trigger e prompts de efeito

**Teste in-game da defesa**: blocker OK (`NAO bloqueia` clicou NoBlocker), counter OK (`0 cartas` → ResolveAttack, dano passou). Mas: (1) crash no trigger; (2) bot travou no prompt "Select 1 Cards to Trash" do proprio lider Teach (efeito ao tomar dano).

**Fix 1 — bug pre-existente no sim_bridge**: `_effects_db = _load_effects_db()` era sempre None (`_load_effects_db()` popula o global `_EFFECTS_DB` do decision_engine e retorna None). `_analysis_db` idem. Fix: carregar e ler os globals do modulo. `resolve_trigger_choice` nunca tinha sido exercitada de verdade.

**Fix 2 — handler generico de prompts de efeito (acaActive)**: resolve tanto o efeito do lider Teach quanto os prompts de On Play (item 2 da fila!).
- Fluxo do jogo: `acaActive != null` → clique em carta vai para `HandleMouseClickDuringCardAction` que valida via `CardIsViableTarget`/V3 e IGNORA cliques invalidos — podemos tentar candidatos em ordem sem risco.
- `POST /choose_target` no server: engine ordena candidatos por zona — own_hand pior primeiro (`avaliar_carta`), own_board menor valor, opp_board maior valor (`char_value_score`), leaders/stages por ultimo.
- `BotDriver.HandlePendingAction`: detecta acaActive novo (por referencia), pede ordem ao engine 1x, clica um candidato por tick (cooldown 0.8s); esgotou → `Cancel`. So age se `FindCardOwner(acaActive.goActor) == botPs` (prompt do humano fica pro humano).
- Roda nos DOIS turnos (On Play no turno do bot; efeitos reativos no turno do humano).

Testes: `resolve_trigger_choice` com effects_db carregado ✓; `/choose_target` ordena corretamente (descarta pior carta primeiro, leader por ultimo) ✓.

Falta testar in-game (reiniciar servidor + jogo).

---

## 2026-07-04 (75) - Claude

### feat: defesa do bot (blocker / counter / trigger)

Decisoes 100% no engine (sem logica de carta no plugin — regra dos dois motores respeitada).

**Fluxo do jogo (verificado no decompilado):**
- `SetupBlockerPhase` alterna `iPlayerAction` para o DEFENSOR → durante `Attack_WaitOnBlocker`/`Attack_WaitOnCounters`, `iPlayerAction == defensor`
- Blocker: clique no personagem via `HandleMouseClickCardAttackBlocker` (jogo valida `CardCanBlock`); recusa = `NoBlocker`
- Counter: `bConfirmCounter = false` (public) + `DiscardCardForCounter(carta)` por counter + `ChoiceButtonClicked(ResolveAttack)`
- Trigger: estado `Life_ActivateTrigger`/`Life_DoubleTriggering`; carta revelada = `LastDrawnCard()`; botoes `Trigger`/`NoTrigger`
- Poder atual (buffs/DON inclusos): `gls.CardPower(go, bAttacking)` — public

**server.py — `POST /defense`** `{state, phase, attackerPower, defenderPower, triggerCode}`:
- blocker → `DecisionEngine.should_use_blocker(atk)` → `{blockerId}` (0 = nao bloqueia)
- counter → `should_use_counter(atk, def)` + selecao minima (menores primeiro, so se cobre o ataque) → `{counterIds}`
- trigger → `sim_bridge.resolve_trigger_choice(gs, code)` → `{useTrigger}`
- Erro → defesa conservadora (nao bloqueia/counteriza/usa trigger)

**Plugin:** `BotDriver.HandleDefense()` roda no turno do humano; `BotExecutor` ganhou `TryBlock`/`NoBlocker`/`PlayCounters`/`ResolveTrigger`/`Attacker`/`Defender`/`PowerOf`/`TriggerCardCode`. Guard `_blockerTried` evita loop se o jogo recusar o blocker.

**Testes (endpoint):** blocker com vida 2 + OP01-014 no campo → bloqueia ✓; counter 6000 vs 5000 (needed 1001) → escolhe exatamente 2x1000 ✓; trigger → decisao do engine ✓.

**Falta testar in-game** (reiniciar servidor + jogo). Trigger do bot em `Life_DoubleTriggering` durante o proprio turno do bot (Double Attack do humano? nao existe — double attack e do atacante; ok) — cobrir depois se aparecer caso.

---

## 2026-07-04 (74) - Claude

### TESTE COMPLETO OK — bot joga turno inteiro sozinho no Solo vs Self

Confirmado pelo usuario com o servidor + dll novos:
- `/mulligan` chamado e respondido no inicio da partida ✓
- Draw Card / Draw Don automaticos ✓
- Plays e attacks executados pelo engine (varios `/decide` por turno, don pago corretamente) ✓
- End turn automatico quando `0 acoes` ✓

**Estado atual do BOT (BepInEx v1.1)**: turno do bot 100% automatico no Solo vs Self.

**Proximos passos sugeridos (por prioridade):**
1. Defesa do bot quando o humano ataca (Blocker/Counter/Trigger — hoje o usuario clica pelos prompts do lado do bot; ha `bAutoNoBlock` nativo como paliativo)
2. Prompts de escolha pos-deploy (efeitos On Play que pedem alvo — ex: "Select 1 Cards to Trash" do Ace)
3. Acoes `activate` e `attach_don` do engine (hoje viram end_turn no server.py)
4. Multiplayer: mudar deteccao de turno/lado (bot = jogador local; testar como o fluxo de rede difere do SoloVSelf)

---

## 2026-07-04 (73) - Claude

### feat: mulligan automatico decidido pelo engine

Teste anterior confirmou: draw/don/end turn automaticos OK. Faltava a decisao de mao inicial.

Fluxo do SoloVSelf no decompilado: `OfferMulligan` → `Start_WaitOnMulliganChoice`; cada lado decide EM SEQUENCIA, controlado por `iPlayerAction` (`CurrentPlayer() = Lps_Players[iPlayerAction]`); apos cada Keep/Mulligan o jogo alterna `iPlayerAction` e re-oferece para o outro lado.

- `server.py`: novo `POST /mulligan` — recebe a mao, chama `match._mulligan_decision(hand, deck=None)` do engine (avalia curva T1/T2/T3, searcher, ramp, counters), retorna `{mulligan, reason}`. Testado: responde com motivo ("curva ok (T1:s T2:s T3:s); tem searcher").
- `EngineClient.ShouldMulligan(hand)` no plugin (default keep em erro).
- `BotDriver`: em `Start_WaitOnMulliganChoice`, se `iPlayerAction == BotPlayerIndex`, decide e clica `StartingHand_Keep`/`StartingHand_Mulligan`.

**IMPORTANTE para o teste**: reiniciar o servidor Python (Ctrl+C e rodar de novo) — o processo antigo nao tem o endpoint /mulligan. E reabrir o jogo (dll nova).

---

## 2026-07-04 (72) - Claude

### fix: auto Draw Card/Don usava estados errados

Os botoes Draw Card/Draw Don ESPERAM em `PlayerTurn_DrawCardWait`/`PlayerTurn_DrawDonWait` — os estados sem "Wait" sao transitorios (PlayerDrawPhase adiciona o choice e troca pro Wait no mesmo frame). Driver corrigido para os estados *Wait. Recompilado.

Descoberta util: o jogo tem `bAutoDraw` (setting) que auto-clica esses botoes para qualquer jogador — alternativa nativa se quisermos.

---

## 2026-07-03 (71) - Claude

### PRIMEIRO TESTE FUNCIONAL + auto Draw Card/Don

**v1.1 FUNCIONOU no Solo vs Self**: log do jogo mostra `[You] Deploy Catarina Devon`, ataques com trigger ativado, `[You] End Turn` — o bot jogou de verdade pelo engine, pagando custos.

Feedback do usuario: no inicio do turno do bot era preciso clicar Draw Card e Draw Don manualmente. Fix: `BotDriver.Update` agora detecta `PlayerTurn_DrawCard`/`PlayerTurn_DrawDon` e clica `ChoiceButtonClicked(DrawCard/DrawDon)` sozinho (cooldown 0.5s). Recompilado, dll em plugins — precisa reabrir o jogo.

---

## 2026-07-03 (70) - Claude

### refactor(BOT): v1.1 — driver Update() substitui hook AddTurn

**Primeiro teste real** (Solo vs Self): plugin carregou, hooks dispararam, engine respondeu — mas nenhuma acao aconteceu no campo. Dois problemas de raiz encontrados no decompilado:

1. **Timing**: em SoloVSelf o `AddTurn` dispara no estado `PlayerTurn_Start` (linha 29071 do GLS), ANTES do untap/draw/don — por isso `mao=5 don=0`. O state machine nao esta em `PlayerTurn_Action`, entao Deploy/StartAttack nao funcionam nesse momento. Alem disso o RunTurn sincrono dentro do hook nao dava tempo do state machine resolver combates.
2. **`atacante -1 nao encontrado`**: leader tem `deckUniqueID = -1`; a busca por uid falhava.

**Nova arquitetura (v1.1):**
- `TurnPatch.cs` e `EngineServer.cs` REMOVIDOS (sem Harmony patch; server inicia manual)
- `BotDriver.cs` (novo): MonoBehaviour criado no Awake do plugin. A cada frame verifica: `e_GameStyle == SoloVSelf`, `iPlayerTurn == BotPlayerIndex(0)`, `e_CurrentState == PlayerTurn_Action`, `acaActive == null`, `acaPending` vazio. Se tudo ok: monta DTO, chama `/decide`, executa UMA acao, cooldown de 1s. Fail-safes: MAX 25 acoes/turno, 2 falhas consecutivas → end turn.
- `BotExecutor.cs` reescrito com o **caminho do clique humano** (o jogo valida e paga custos sozinho):
  - play: `HandleMouseClickCardDuringActionState(card)` → verifica `go_PendingChoice == card` (jogo aceitou) → `ChoiceButtonClicked(Deploy)` → `Deploy()` paga custo via `TapDon` (chamar `DeployCardFromHand` direto NAO paga custo = trapaça!)
  - attack: valida turno > 1 e nao-rested → `go_PendingChoice = atacante` → `StartAttack()` → `HandleMouseClickCardAttackTarget(alvo, false)`
  - end turn: `bConfirmEnd = false` (public) → `ChoiceButtonClicked(EndTurn)`
  - Lider com uid -1: fallback compara `action.cardId` com o uid que NOS enviamos no DTO (`dto.bot.leader.deckUniqueId`)
- Recompilado; dll atualizada em BepInEx\plugins.

**Pendencias conhecidas (MVP):**
- Defesa do bot (blocker/counter/trigger quando o humano ataca): NAO implementada — o usuario clica pelos prompts do lado do bot durante o teste (ou ativar bAutoNoBlock do jogo)
- Tipos de acao `activate`/`attach_don` do engine viram end_turn no server.py
- Precisa fechar e reabrir o OPTCGSim para carregar a dll nova

---

## 2026-07-03 (69) - Claude

### fix(BOT): lados dos jogadores corrigidos no plugin

Usuario questionou "como sabe que o P1 e o topo?" — auditoria no decompilado revelou que o plugin estava INVERTIDO:

- `GameStartSolo()`: `LoadMyDeck(Lps_Players[0])` / `LoadEnemyDeck(Lps_Players[1])`
- **Lps_Players[0] = "You" = lado de BAIXO** (orientacao normal na tela)
- **Lps_Players[1] = "Opponent" = lado de CIMA** (cartas invertidas)
- `AddTurn(..., isPlayer1TurnStarting = CurrentPlayer() == Lps_Players[0])`

O plugin agia quando `isPlayer1TurnStarting == false` (= turno do lado de CIMA). Corrigido: bot agora e o **player 0 (baixo, [You])** — igual sera no multiplayer (lado local = baixo). Constante `AddTurnPatch.BotPlayerIndex = 0` centraliza a escolha; `GameStateBuilder.Build(botPs, oppPs, gls)` recebe os lados explicitos; `BotExecutor` usa o indice.

Nota: no Solo vs Self o humano joga o lado de CIMA ([Opponent]) e o bot responde pelo de baixo. Os snapshots do bot antigo (bot_optcgsim.py OCR) assumiam bot = [Opponent] — o bot OCR e o plugin usam convencoes OPOSTAS; nao misturar.

Recompilado com sucesso, dll atualizada em BepInEx\plugins.

Limitacao conhecida: `AddTurn` so dispara apos o primeiro `EndTurn` — se o bot (player 0) comecar a partida, ele nao age no turno 1 (o humano precisa passar o primeiro turno dele para destravar o fluxo). Resolver depois se incomodar.

---

## 2026-07-03 (68) - Claude

### BOT compilado + servidor testado de ponta a ponta

**Setup concluido:**
- .NET SDK 8.0.422 instalado (winget)
- BepInEx 5.4.23.2 (binario win x64) extraido em `E:\Games\OnePieceSimulador\Builds_Windows\` (`winhttp.dll` + `BepInEx\core\`); pasta de codigo-fonte baixada por engano foi removida
- `OPTCGBotPlugin.dll` compilado com sucesso e copiado para `BepInEx\plugins\`

**Correcoes no build:**
- `.csproj`: pacotes NuGet BepInEx nao existem no nuget.org → referencia direta as DLLs locais (`BepInEx\core\BepInEx.dll`, `0Harmony.dll`)
- Jogo usa netstandard 2.1 (Unity Mono moderna) → adicionadas referencias a `netstandard.dll` e `System.Net.Http.dll` do `Managed\` do jogo
- PostBuildEvent xcopy falhava (`$(TargetPath)` vazio) → trocado por `<Target Name="CopyToPlugins">` com task `<Copy>`

**server.py reescrito e validado:**
- `choose_action` exige `OPTCGMatch` → `_get_match()` lazy cria um com o primeiro deck disponivel (match e so maquinaria; GameStates reais vem do DTO)
- `GameState` exige `leader` → construido a partir do leader do DTO
- Formato da action confirmado no engine: `(score, tipo, card, ttype, tgt)` — attack usa `action[3]='leader'|'character'` e `action[4]=tgt_card`
- `gs.turn = max(2, turnNumber)` (can_attack_this_turn exige turn > 1)
- **Smoke test OK**: `/health` → ok; `/decide` com estado realista → `{"type":"attack","cardId":100,"targetId":0}` (lider ataca lider — decisao correta)

**Falta**: rodar o OPTCGSim com o plugin carregado e testar Solo vs Self de verdade.
Fluxo de teste: `python BOT/engine_server/server.py` → abrir OPTCGSim → Solo vs Self.
Log do plugin: `BepInEx\LogOutput.log`.

Housekeeping: `BOT/.gitignore` criado (bin/obj do plugin fora do repo; tinham sido commitados por engano e foram removidos do tracking).

---

## 2026-07-03 (67) - Claude

### fix(BOT): nomes de campos/metodos verificados contra o decompilado

Auditoria dos nomes usados no plugin C# vs `dnspy-export/Assembly-CSharp/`:

| Estava no plugin | Nome real verificado |
|---|---|
| `bJustPlayed` | `bSummonSick` (LiveCard e **struct** — leitura ok, escrita nao persiste) |
| `iPower` | `cardPower` |
| `cardDef.sCode` | `cardDef.cardID` |
| `cardDef.iCost` | `cardDef.cardCost` |
| `Lgo_MyBoard` | `Lgo_MyDeploy` |
| `Lgo_MyLife` | `Lgo_MyLifeDeck` |
| `StartAttackInternal()` | nao existe — fluxo real: `go_PendingChoice = atacante` → `StartAttack()` → `HandleMouseClickCardAttackTarget(alvo, false)` |

Membros **private** (precisam de AccessTools/Harmony):
- `GameplayLogicScript.go_PendingChoice`, `DeployCardFromHand`, `StartAttack`, `HandleMouseClickCardAttackTarget`
- `GameStateManager.gls` → resolvido com injecao `___gls` no patch Harmony

Publicos confirmados: `EndTurn_Internal()`, `Lps_Players`, `gsv_CurrentGame`, `Lgo_MyHand`, `Lgo_MyLeader`, `Lgo_MyDonCostArea`.

Outras correcoes:
- `activeDon` agora conta so DON **nao-tapped** na cost area (antes contava tudo)
- `GameStateBuilder` reescrito com null-checks estilo Unity (`go != null ? GetComponent : null`)
- `.csproj` ganhou `<LangVersion>latest</LangVersion>` (sintaxe C# 9 com target net46)

Ainda falta: instalar BepInEx, compilar (`dotnet build`), testar em Solo vs Self.

---

## 2026-07-03 (66) - Claude

### feat: BOT/ — arquitetura BepInEx para integrar engine diretamente no OPTCGSim

Criada pasta `BOT/` com duas sub-partes:

**`BOT/OPTCGBotPlugin/`** — plugin C# para BepInEx 5.x (Unity Mono)
- `OPTCGBotPlugin.csproj` — projeto .NET 4.6, referencia BepInEx + DLLs do jogo
- `Plugin.cs` — entrada BepInEx, inicia o servidor Python e aplica patches Harmony
- `GameStateDto.cs` — DTOs para serializar estado do jogo em JSON
- `GameStateBuilder.cs` — converte `PlayerState` (objetos Unity vivos) → `GameStateDto`
- `EngineClient.cs` — cliente HTTP que chama `localhost:8765/decide`
- `TurnPatch.cs` — `[HarmonyPatch] GameStateManager.AddTurn` → detecta turno P2, chama engine
- `BotExecutor.cs` — traduz ação JSON do engine → chama `EndTurn_Internal`, `DeployCardFromHand`, `StartAttackInternal`
- `EngineServer.cs` — inicia `server.py` como processo filho

**`BOT/engine_server/server.py`** — FastAPI em `localhost:8765`
- `GET /health` — verifica se server está vivo
- `POST /decide` — recebe `GameStateDto`, converte para `GameState` do engine, chama `bridge.choose_action`, retorna `{type, cardId, targetId}`

**Próximos passos:**
1. Instalar BepInEx 5.x em `E:\Games\OnePieceSimulador\Builds_Windows\`
2. Compilar o plugin: `dotnet build BOT/OPTCGBotPlugin/`
3. Verificar nomes exatos dos campos de `LiveCard`, `PlayerState`, `GameplayLogicScript` — alguns podem diferir do decompilado (ex: `bJustPlayed`, `Lgo_MyHand`, `StartAttackInternal`)
4. Testar com Solo vs Self

---

## 2026-07-03 (65) - Claude

### Fix: suporte a Solo vs Self (log formato real do simulador)

Análise do arquivo `.log` real revelou 3 problemas que impediam o bot de funcionar:

**1. Regex de código de carta errada**
Formato real: `["OP13-043">OP13-043]` — não `<link="...">` nem `[CODE]`.
Fix: `_RE_CODE = re.compile(r'"([A-Z]{1,4}\d{2}-\d{3}[a-z]?)">')` — casa o formato real; fallback `_RE_CODE_BARE` mantido para compatibilidade.

**2. Snapshots usam `[]` sem nome**
Formato real: `[] Hand: [OP13-042,...]` — não `[You] Hand:`.
Fix: `_RE_SNAP_*` agora aceita nome vazio `([^\]]*)`; lógica de atribuição usa `_snap_anon_idx` (contador por chamada) + `_last_end_turn` para determinar dono:
- `_last_end_turn == "You"` → 1° bloco = bot (Opponent), 2° = opp (You)
- `_last_end_turn == "Opponent"` ou `""` (game start) → 1° = opp (You), 2° = bot (Opponent)
Counter reseta a cada linha de ação não-snapshot.

**3. Detecção de nome no Solo vs Self**
`_detect_names_from_log` sem `Has Connected` caía no fallback que retornava `You` como `_our_name` (errado — bot é Opponent/P2).
Fix: se `You` e `Opponent` estão nos leaders sem `Has Connected` → retorna `("Opponent", "You")`.

Globais adicionados: `_last_end_turn` (resetado em `_reset_log`), `global _last_end_turn` em `apply_log_delta`.

---

## 2026-07-03 (64) - Claude

### CLAUDE.md atualizado: leitura de memórias obrigatória antes de cada commit

Adicionado bloco "LEITURA OBRIGATÓRIA ANTES DE QUALQUER COMMIT" no topo de `CLAUDE.md`.
O bloco aponta para `memory/MEMORY.md` e resume as duas regras críticas:
- Bot = olhos/mãos; engine = cérebro; sem dois motores (`feedback_dois_motores.md`)
- Objetivo do bot: logs → engine → front-end (`project_objetivo_bot.md`)

Arquivos de memória criados na sessão anterior (fora do repo, em
`C:\Users\arthu\.claude\projects\...\memory\`): `MEMORY.md`, `feedback_dois_motores.md`, `project_objetivo_bot.md`.

---

## 2026-07-03 (63) - Claude

### Refactor: lógica de trigger movida do bot para sim_bridge

`_should_use_trigger()` em `bot_optcgsim.py` consultava o effects_db e tomava decisão estratégica — violação da regra "bot = olhos/mãos, engine = cérebro, sem dois motores".

Fix: bot agora só detecta pixels (`_is_trigger_step`) e lê o nome da carta pelo preview OCR, depois delega para `bridge.resolve_trigger_choice(gs, card_code)` em `sim_bridge.py`. Toda a lógica de decisão (quais actions valem o trigger, checagem de mão/vida) ficou em `sim_bridge.resolve_trigger_choice`.

---

## 2026-07-03 (62) - Claude

### 4 bugs corrigidos proativamente

**Bug 2 — `_reset_log()` mid-game (grave)**
`_reset_log()` era chamado toda vez que a Main Phase era detectada (turno 2+). Isso zerava `_log_file_offset` e `_log_search_after`, fazendo o bot parar de receber eventos do log a partir do segundo turno.
Fix: removido o `_reset_log()` do bloco `if detected`. O arquivo de log é único por partida, o offset continua válido entre turnos.

**Bug 1 — `just_played` nunca limpo**
Personagens marcados `just_played=True` ao entrar no campo nunca tinham esse flag removido. `PRE-FAIL: just_played sem Rush` impedia ataques para sempre.
Fix (duplo): (1) no início de cada Main Phase detectada, itera `gs.field_chars` e zera `just_played`; (2) em `apply_log_delta` ao ver `Draw #N Card` nosso, também zera (garante mesmo se a Main Phase não for re-detectada).

**Bug 3 — DON drift entre turnos**
`don_available` acumulava entre turnos: `ActionActivateDon` somava DON, e o `Draw Don` do turno seguinte somava de novo. Podia inflar sem teto.
Fix: ao detectar Main Phase, lê o DON real via OCR hover badge (`_read_don_active`) e usa esse valor como ground truth, sobrescrevendo o acumulado.

**Bug 4 — Triggers ignorados (448 cartas afetadas)**
Quando uma carta de vida era revelada com Trigger, apareciam dois botões `Use Trigger Effect` / `No Trigger Effect`. O bot sempre clicava `No Trigger Effect`.
Fix: nova função `_is_trigger_step()` faz OCR rápido do botão TOP e checa se contém "trigger" sem "no". Nova função `_should_use_trigger(gs)` lê o nome da carta via preview OCR, busca no effects_db os steps do trigger, e decide: triggers de ko/bounce/draw/buff → usa sempre; trash da mão → só usa se tiver mão; default → usa. Integrado em: loop principal (dois botões fora da Main Phase), `_handle_prompts`. Logs: `T+` (usou) ou `T-` (não usou).

---

## 2026-07-03 (61) - Claude

### Item 3: steps do on_play guiam seleção de alvos nos prompts

**Motivação**: `resolve_prompt_choice` escolhia alvos de forma genérica (maior board_value no campo oponente). Com `action_system.py` como referência, percebemos que cada step de efeito tem filtros precisos (cost_lte, rested_only, power_lte...) que determinam quais alvos são válidos. Extraímos essa informação do nosso `card_effects_db.json` existente.

**Mudanças em `sim_bridge.py`**:
- `get_card_on_play_steps(card_code)` — devolve lista de steps do on_play do effects_db
- `_step_matches_zone(step, zone)` — heurística: o step corresponde à zona OCR detectada?
- `_choose_opp_target_filtered(candidates, step)` — filtra alvos oponente por cost_lte/cost_eq/rested_only/power_lte; para `bounce` prefere maior custo, para `ko` prefere maior ameaça
- `resolve_prompt_choice` agora aceita `steps: list[dict]` — se o step matchado tiver filtros, aplica antes do fallback genérico; se nenhum alvo válido sobrar, retorna `click_button` (efeito opcional/sem alvo)

**Mudanças em `bot_optcgsim.py`**:
- `_resolve_post_deploy(card_code=None)` — carrega on_play steps do bridge e repassa para `_resolve_prompt_with_engine`
- `_try_deploy_card(card_code=None)` — recebe e passa o code da carta deployada
- `_execute_engine_action` — passa `card_code=code` para `_try_deploy_card`
- `_resolve_prompt_with_engine(on_play_steps=None)` — passa steps para `resolve_prompt_choice`

**Efeito prático**: ao jogar uma carta como Brook (on_play: `ko opp_character cost_eq=0`), o bot agora só clica em personagens do oponente com custo 0, em vez de clicar no mais forte. Se não houver, retorna `click_button` (cancela).

---

## 2026-07-03 (60) - Claude

### Item 1: eventos faltantes do log em apply_log_delta

Usando os templates `Log.*` do `TRANSLATION.txt` do simulador, adicionamos eventos que antes eram ignorados:

- **`SelfToHand`** `Return $2 to Hand`: carta nossa voltou da field/trash para a mão (`needs_hand_rescan=True`)
- **`Destroyed`** `$1 Destroyed`: alias do K.O., remove do campo e vai pro trash (juntado ao elif de K.O.)
- **`Deploy from Trash`** / **`Deploy from Deck`**: tratados separados do deploy da mão (não tenta remover da mão)
- **`ActionActivateDon`** `Activate #1 Don`: DON ativado (fim de turno oponente) → `don_available += N`, `don_rested -= N`
- **`DonMinus`** `Minus #1 Don`: DON removido permanentemente por efeito do oponente
- **`RestDon`** `Rest #1 Don`: agora move `don_available→don_rested` corretamente (antes só subtraía)
- **`SetOtherRest`** `Rest $2`: marca `card.rested = True` no personagem do campo
- **`SetActive` / `SetOtherActive`**: marca `card.rested = False` no refresh/reativação
- **`Attack` attacking**: marca atacante como `card.rested = True`
- **`just_played = True`** no Deploy: personagens recém-entrados ficam marcados (sem Rush não atacam)
- Fix colateral: `'Draw ... Card'` agora exclui `'from'` para não conflitar com `DrawFromTrash`
- Fix: `'Trash'` check agora exclui `'Draw'` e `'from Trash'` para não comer saques do trash

### Item 2: pré-validação em sim_bridge.py antes de executar ação

Nova função `can_execute_action(action, gs) -> (bool, str)` em `sim_bridge.py`:
- **play**: checa `don_available >= cost`, carta na mão, `_sim_x > 0`
- **attack**: checa carta no campo, `not rested`, `not just_played` (sem Rush)
- **activate**: checa carta no campo (exceto LEADER/STAGE)

Integrada no loop principal de `bot_optcgsim.py` antes de `_execute_engine_action`:
- Se `PRE-FAIL`: para play → remove da mão (engine não re-propõe); para attack → encerra ações do turno
- Loga `[PRE-FAIL] TIPO código: motivo` para diagnóstico

Também removida linha órfã `_log_lines_seen[:] = _read_log_lines()` que ficou da refatoração anterior.

---

## 2026-07-03 (59) - Claude

### Refatoração: leitura direta do arquivo .log (abandona OCR do painel de log)

**Motivação**: OCR do painel esquerdo era impreciso, lento e só via as últimas linhas visíveis. O OPTCGSim escreve um arquivo `.log` em `CombatLogs/AutoSaved/` com todo o histórico da partida em tempo real.

**O que mudou em `bot_optcgsim.py`**:
- Removido: `LOG_BBOX`, `_read_log_lines()`, `read_log_delta()` via OCR, import `ImageOps`
- Adicionado: `COMBAT_LOG_DIR`, `_current_log_file`, `_log_file_offset`, `_our_name`, `_opp_name`, `_log_search_after`
- `_find_current_log()`: acha o `.log` mais recente criado após o reset da partida
- `_detect_names_from_log()`: detecta nome do jogador local via `"NAME Has Connected"` no cabeçalho
- `read_log_delta()`: lê bytes novos do arquivo por offset, filtra linhas `RZ1|` (protocolo de máquina)
- `_codes_from_log_line()`: extrai codes do formato `<link="CODE">` (e fallback `[CODE]`)
- `apply_log_delta()`: adicionado parser de **snapshots completos** emitidos após cada turno:
  - `[NAME] Hand: [CODE1,CODE2,...]` → sync completo da mão (inclui `needs_hand_rescan=True`)
  - `[NAME] Board: [CODE1,...]` → sync do campo
  - `[NAME] Trash: [CODE1,...]` → sync do trash
  - `[NAME] Life: N` → sync de vida
  - Detecção `is_you`/`is_opp` agora usa `_our_name`/`_opp_name` em vez de `[You]`/`[Opponent]`

**Estado atual**: código salvo, sintaxe OK. **Não testado ainda em partida real** — próxima sessão deve rodar o bot e observar se os snapshots são lidos corretamente (procurar `[LOG] arquivo=...` no output).

**Atenção**: formato do snapshot no log real pode precisar de ajuste. Verificar arquivo `.log` gerado durante a partida para confirmar o padrão exato de `Hand:`, `Board:`, `Trash:`, `Life:` (pode ser diferente do esperado — ver log de 2026-07-03T13.28.12.log como referência).

---

## 2026-07-03 (58) - Claude

### Bug crítico resolvido: posições stale causavam F em cascata

**Sintoma observado**: bot fazia muitos `F(código)` seguidos mesmo com DON suficiente — visualmente parecia "só passar o mouse e passar a vez".

**Causa raiz**: após um deploy bem-sucedido, o código filtrava `hand_cards` mas mantinha os `_sim_x` antigos. O OPTCGSim reposiciona as cartas restantes ao retirar uma, então as posições x ficavam stale. O bot clicava no lugar errado → simulador não abria Deploy prompt → `_try_deploy_card=False`.

**Fix** (`bot_optcgsim.py` ~linha 1186): após cada play bem-sucedido, chama `scan_hand()` + `bridge.sync_hand()` para obter posições frescas antes da próxima ação.

**Investigação via `validators.py`**: confirmado que a validação do engine está correta — o problema NÃO era custo de DON, era posição visual stale.

---

## 2026-07-03 (57) - Claude

### Fixes desta sessão (rodada de observação)

**`bot_optcgsim.py` — `_read_prompt_text` filtra lixo OCR**
- A segunda bbox `(930,490,1275,610)` lia arte de carta durante o jogo normal e gerava texto garbage ("se oe oe al: Xt - on yeaa")
- Fix: só inclui o texto de uma bbox se contiver pelo menos 1 palavra-chave de prompt (`_PROMPT_KEYWORDS` regex). Elimina ruído sem precisar remover a bbox útil para Blocker/Counter Step.

**`sim_bridge.py` — `resolve_prompt_choice` dois fixes**
- `own_field` com `gs.field_chars` vazio → antes retornava `None` (sem intent); agora retorna `click_button/main` ("no own chars")
- `"Use Card Action"` e `"Cancel"` adicionados em `_CONFIRM_KWS` → clica botão principal em vez de retornar None

---

## 2026-07-03 (56) - Claude

### Fixes desta sessão

**`sim_bridge.py` — `_prompt_zone`**
- "Select 1 More Friendly Targets" agora mapeia para `own_field` (regex expandido para incluir "friendly" e "target")

**`bot_optcgsim.py` — trash zone handler**
- Constantes: `TRASH_P2 = (863, 634)`, `TRASH_VIEW_Y = 550`, `TRASH_VIEW_XS = [120,195,265,335,395]`, `TRASH_ARROW_R = (427, 550)`
- Nova função `_click_card_in_trash_view(target_code)`: abre trash via clique em `TRASH_P2`, hover-scan cada posição na row y≈550, lê preview para identificar code, clica o alvo; pagina com seta direita até 3x; fallback: clica primeira posição
- `_execute_prompt_intent`: novo branch `zone == 'trash'` → chama `_click_card_in_trash_view`

**`bot_optcgsim.py` — botão extra y≈515 (multi-efeito Activate:Main)**
- `_click_activate_button` verifica pixel em y≈515 antes do top normal (y≈578) — cobre cartas com 2 opções de efeito como Kouzuki Oden ("Attach All Active Don" / "Action:(3)...")

### Pendências abertas
- **Confirmar `TRASH_P2 = (863, 634)`**: rodar bot e mandar screenshot quando trash precisar ser aberto para calibrar posição exata
- **Confirmar y=515 para botão extra do Oden**: verificar após teste se o pixel detecta corretamente
- **OP13-082 deploy com 7 cartas**: posição 282 falha consistentemente — investigar hitbox da mão cheia
- **Trigger Step**: após dano de ataque, o trigger step pode pedir interação — não mapeado ainda
- **Rotacionar chave Supabase** antes de deploy público (pendência de segurança)

---

## 2026-07-03 (55) - Claude

### Observação arquitetural (IMPORTANTE — nunca violar)

> **O Engine é o cérebro. O Bot é os olhos e as mãos.**

- **Bot (`bot_optcgsim.py`)**: só lê a tela (OCR, scan de cartas/campo), converte em dados estruturados e clica nos botões. Não toma decisões de jogo.
- **Engine (`decision_engine.py` via `sim_bridge.py`)**: recebe o `GameState` montado pelo bot e decide qual ação tomar.
- **Regra**: nunca implementar lógica de "qual carta jogar", "qual alvo atacar" ou "qual carta descartar" no bot. Toda decisão vai para o engine. O bot apenas executa a intenção devolvida.
- Isso evita o problema de ter dois motores divergindo. O `sim_bridge.py` é a ponte: recebe dados visuais do bot → alimenta o engine → devolve intenção clicável.

### Fix aplicado nesta sessão
- **Loop infinito `S(play:OP14-096)`**: quando um `play` estava em `used_engine_actions` e o skip disparava, o `continue` re-chamava o engine sem remover a carta de `gs.hand`, causando loop eterno.
- Fix: ao skippar um `play`, o bot agora remove a carta de `gs.hand` localmente (`gs.hand = [c for c in gs.hand if c is not skip_card and c.code != skip_code]`) antes do `continue`, quebra o loop.
- Arquivo: `scriptis_da_ia/bot_optcgsim.py` (~linha 1038).

### Problema aberto: bot não joga cartas (engine parece não funcionar)
Sintoma reportado: bot roda mas não executa plays. Hipóteses prováveis:

1. **`gs.hand` vazio quando engine é chamado** — `sync_hand()` no bridge pode não estar sendo chamado antes de `choose_action()`, ou o scan visual retorna lista vazia.
2. **`gs.don_available` = 0** — DON não está sendo sincronizado corretamente do estado visual para o `GameState` antes da chamada ao engine.
3. **Engine retorna `None`** — `_generate_and_score_actions` não encontra ação viável (score < 0) porque o `GameState` está incompleto (sem mão, sem DON, turn=0).
4. **`hand_x` não encontrado** — `_execute_engine_action` acha action de `play` mas `hand_cards` visual não tem o código da carta escolhida pelo engine (mismatch entre código no banco e código escaneado pela OCR).

### Análise real do log (3 partidas rodadas)
- **O engine funciona**: DON e hand estão sendo sincronizados corretamente. O engine propõe ações válidas e o bot executa: OP05-089, OP14-096, OP13-098, OP01-074, OP13-086 foram jogados com sucesso.
- **`_try_deploy_card=False`** ocorre quando o simulador NÃO abre o prompt Deploy/Cancel após o clique. Dois padrões:
  1. **`OP13-082` sempre falha** (hand_x=282) — provável regra do jogo que o engine não modela. O sim verifica uma condição de jogo que bloqueia o deploy silenciosamente.
  2. **`OP14-096` falha às vezes** (hand_x=317 falha, hand_x=282 funciona mesmo turno seguinte) — posição stale em `hand_cards`; a carta estava na posição 317 durante o scan mas o clique não acertou o hitbox.
- **`[fim detectado]` após OP13-086** — parece CORRETO: Imu (OP13-086) tem efeito que pode finalizar o jogo (DON explode para 7+), o simulador encerrou a partida.
- **Fix aplicado**: após `F(code)` (deploy falhou), `scan_hand()` é chamada imediatamente para garantir posições frescas antes da próxima tentativa.

### Cards identificados e fluxo de prompts (imagens vistas)
- **OP13-082 (Five Elders)** — CHARACTER 10/12000 com `Activate:Main`: rest 1 DON + trash 1 da mão → trash TODOS os personagens do campo → jogar até 5 [Five Elders] do trash. O deploy (custo 10) deveria funcionar normalmente; as falhas provavelmente são posição stale (282 com 7 cartas na mão). Após o activate, sequência de prompts: DON select → trash mão → trash personagens próprios → escolher Five Elders do trash.
- **OP13-086 (Saint Shalria)** — CHARACTER 1/0 Counter+1000 com `On Play`: olhar 3 cartas do topo → revelar até 1 [Celestial Dragons] → adicionar à mão → trashar o resto → trashar 1 da mão. Após o deploy, sequência de prompts: escolher Celestial Dragons (ou confirmar) → trash restantes → trash 1 da mão.

### Princípio arquitetural aplicado nos prompts (IMPORTANTE — não reverter)
O bot NÃO deve ter lógica por carta ("if five elders, do X"). Ele lê a tela e identifica
genericamente ZONA + AÇÃO + CONTAGEM a partir do texto OCR. O engine/bridge decide o que clicar.

### Mudanças aplicadas
- `sim_bridge.py`: `resolve_prompt_choice` reescrito com parser genérico (`_prompt_zone` + `_prompt_count`).
  Detecta por estrutura do texto, sem mencionar nenhuma carta:
  - zona `don` → `click_don`; zona `trash` → confirma (bot não escaneia trash ainda)
  - zona `revealed` → confirma; zona `hand` → engine escolhe pior carta
  - zona `opp_field` → engine escolhe maior valor; zona `own_field` → engine decide
  - count `0` → confirma sem escolha
- `bot_optcgsim.py`: `_execute_prompt_intent` trata `click_don` → clica `DON_P2_HOVER`
- `bot_optcgsim.py`: `_resolve_post_deploy` de 15 → 25 iterações

### Mapeamento de UI obtido por screenshots (partida observada)
- Botão `main` em y≈638 cobre: "No Blocker", "Resolve Attack", "Return Cards to Deck", "Choose 0 Targets"
- "Blocker Step" / "Counter Step" textos aparecem em y≈490–610 (ACIMA do bbox antigo)
- Trash P2: clicável em ~x=863, y=633 no board; abre visualização **acima da mão**
- Setas scroll da mão (mão cheia): esquerda ~x=83, direita ~x=427, y≈553

### Sequência de ataque (novo conhecimento)
Quando oponente ataca: Blocker Step → Counter Step → (Trigger Step se dano)
- Blocker Step: bot clica "No Blocker" (main button) — por ora não bloqueia
- Counter Step: bot verifica gs.hand por counter cards; se tiver joga o melhor, senão "Resolve Attack"

### Mudanças implementadas
- `apply_log_delta`: rastreia cartas para `gs.trash` via log ("Discard [CODE] for Counter", "Trash [CODE]", "K.O.")
  — sem precisar de scan visual do trash
- `PROMPT_TEXT_BBOXES`: adicionado bbox (930, 490, 1275, 610) para capturar textos de fase mais altos
- `_prompt_zone`: zonas "blocker" e "counter" adicionadas
- `resolve_prompt_choice`:
  - zone "blocker" → "No Blocker" (main)
  - zone "counter" → engine escolhe melhor counter da mão; senão "Resolve Attack"
  - zone "trash" → engine escolhe maior board_value de `gs.trash` (rastreado pelo log)

### O que ainda falta
- **Clicar carta do trash** (zona "trash"): `_execute_prompt_intent` recebe `zone="trash"` mas não sabe onde clicar visualmente — o trash precisa ser aberto (clicar em x=863, y=633) e então as cartas ficam acima da mão. Implementar scan do trash aberto.
- **Deploy de OP13-082 com 7 cartas na mão**: posição 282 pode estar fora do hitbox. Investigar.
- **Counter step**: bot hoje joga o counter de maior valor mas não avalia se o ataque vale ser bloqueado. Lógica futura: comparar poder do ataque vs vida restante.

---

## 2026-07-03 (54) - Codex
**PROMPT_TEXT_BBOX calibrado em prompt real**

### Feito
- Novo script: `scriptis_da_ia/calibrar_prompt_bbox.py`.
- Ele nao clica e nao roda partida; apenas captura a tela atual, testa candidatos de bbox, salva crops e imprime OCR.
- Saida em: `scriptis_da_ia/_debug_prompt_bbox/`.
- `PROMPT_TEXT_BBOX` em `bot_optcgsim.py` atualizado para `(915, 500, 1265, 585)`.

### Resultado da calibracao real
- Tela do OPTCGSim estava em prompt textual.
- Melhor candidato: `prompt_text_wide = (915, 500, 1265, 585)`.
- OCR lido exatamente:
```
Select 1 Cards to Trash
```
- O bbox antigo `(930, 445, 1240, 620)` misturava preview da carta e leu principalmente `Saint.Marcus.Mars`, portanto estava alto demais.
- Segunda leitura em outro prompt mostrou:
```
Choose 0 Enemy Characters
```
- Esse texto fica mais baixo; `bot_optcgsim.py` agora usa `PROMPT_TEXT_BBOXES` com:
  - `(915, 500, 1265, 585)` para prompts altos;
  - `(910, 500, 1265, 690)` para prompts baixos.
- `sim_bridge.resolve_prompt_choice()` agora trata `Choose 0/Select 0 ... Character` como `click_button` sem inventar alvo, e aceita `enemy` como sinonimo de oponente.

### Como recalibrar se a UI mudar
1. Deixar o OPTCGSim visivel exatamente em um prompt textual.
2. Rodar:
```
python scriptis_da_ia\calibrar_prompt_bbox.py
```
3. Conferir `overlay.png` e os crops em `_debug_prompt_bbox`.
4. Copiar o melhor bbox para `PROMPT_TEXT_BBOX` em `bot_optcgsim.py`.

---

## 2026-07-03 (53) - Codex
**Prompt resolver: bot classifica OCR, engine escolhe o clique**

### Decisao arquitetural
- O bot NAO deve decidir "melhor alvo", "pior carta para trash" ou "melhor carta para add".
- O bot so deve:
  1. ler/classificar o prompt visual do OPTCGSim;
  2. pedir ao bridge/engine a intencao clicavel;
  3. clicar carta/botao.
- Isso evita criar um segundo motor dentro do bot.

### Mudancas
- `sim_bridge.py`
  - Novo `resolve_prompt_choice(gs, opp_gs, prompt_text)`.
  - Usa heuristicas ja existentes do engine:
    - `DecisionEngine.choose_to_trash(gs.hand)` para discard/trash de mao.
    - `choose_highest_board_value()` para alvos de personagem proprio/oponente.
  - Retorna intencoes simples: `click_card` com `zone/code/name` ou `click_button`.
  - Trata `Trash Remaining/Rest` como confirmacao de botao, nao como descarte de mao.
- `bot_optcgsim.py`
  - Novo `PROMPT_TEXT_BBOX` e `_read_prompt_text()`.
  - Novo `_resolve_prompt_with_engine(...)`.
  - `_resolve_post_deploy()` tenta resolver prompt via engine antes de clicar botao unico.
  - Loop pos-ataque tambem tenta resolver prompt via engine antes de clicar botao.
  - `play`/`activate` passam `gs/opp_gs/hand_cards/board_cards/opp_board_cards` para o resolvedor.

### Validacao
- `python -m py_compile scriptis_da_ia\bot_optcgsim.py scriptis_da_ia\optcg_engine\sim_bridge.py`

### Risco restante
- `PROMPT_TEXT_BBOX = (930, 445, 1240, 620)` e estimado; precisa calibrar com screenshot real do prompt.
- O resolvedor ainda cobre classes genericas iniciais: trash de mao, trash de personagem proprio, escolher personagem proprio/oponente e confirmacoes. Nao cobre ainda prompts de cartas reveladas com coordenadas proprias fora de mao/campo.

---

## 2026-07-03 (52) - Codex
**Auditoria estatica: bot executava mal activate/attach/attack mesmo com engine certo**

### Achados corrigidos sem rodar simulacao
1. **Campo visual cego**: no inicio da Main Phase o bot fazia `scan_hand()` e zerava `board_cards`. Resultado: engine podia escolher `activate`, `attach_don` ou ataque com personagem, mas o bot nao tinha coordenadas confiaveis para clicar.
   - Fix: scan leve `scan_hand()` + `scan_board_p2()` + `scan_opp_board()` no inicio da Main Phase; sincroniza `gs.field_chars` e `opp_gs.field_chars` no bridge.
2. **Ataque ignorava alvo do engine**: `attack` em personagem inimigo podia virar fallback para leader se nao achasse a fonte.
   - Fix: `_execute_engine_action()` agora usa `action[3]`/`action[4]`, arrasta da fonte real para leader ou para o alvo personagem real. Se nao souber posicao, falha fechado em vez de atacar alvo errado.
3. **Duplicatas com mesmo code**: activate/attack/attach podiam clicar a primeira copia do codigo, nao a copia escolhida pelo engine.
   - Fix: preferir `_sim_x/_sim_y` gravado pelo `sync_field`; `_action_once_key()` inclui posicao quando existe.
4. **Activate marcava tudo como rested**: `_consume_engine_action_locally()` marcava `activate` como rested sempre. Para Imu (`OP13-079`), Activate:Main compra carta/trasha Celestial Dragon e NAO resta o leader; isso podia impedir ataque depois.
   - Fix: activate so marca rested se o custo em `card_effects_db.json` inclui `rest_self`, `rest_self_and_trash_hand` ou `rest_self_and_leader_or_stage`; tambem marca `_am_used_turn = gs.turn`.
5. **Prompt unico clicava coordenada errada**: em alguns handlers, quando so havia botao de cima, o bot ainda clicava `C_BTN_MAIN`.
   - Fix: helper `_click_detected_button(top, main)` clica no botao realmente detectado.
6. **Campo apos play ficava stale**: apos jogar personagem, o estado local tinha a carta, mas `board_cards` nao tinha coordenada visual.
   - Fix: apos `play`, reescaneia `scan_board_p2()` e sincroniza campo.

### Validacao
- `python -m py_compile scriptis_da_ia\bot_optcgsim.py scriptis_da_ia\optcg_engine\sim_bridge.py`

### Risco restante
- Ainda sem teste real no simulador por decisao do usuario para poupar creditos.
- Efeitos On Play que exigem selecao de alvo especifico continuam dependendo do comportamento generico dos prompts; a proxima auditoria barata deve procurar cartas do deck Imu com On Play/Activate que abrem selecao de alvo e mapear se o bot precisa clicar alvo, nao apenas confirmar botao.

---

## 2026-07-03 (51) - Codex
**Fix residual: OP13-086 nao causa fim de jogo; resolver prompt unico pos-deploy**

### Achado
- `AGENTS.md` nao existe na raiz do repo; busca por `AGENTS.md/agents.md/.agents/**` nao retornou arquivo.
- `main` esta alinhada com `origin/main` em `498f3b7`.
- `OP13-086` = Saint Shalria. Efeito: olha 3 do topo, adiciona 1 Celestial Dragons, trasha o resto e trasha 1 da mao. Nao causa dano massivo; a hipotese de fim correto por dano cai.
- Regressao encontrada: em `115acd2`, `_resolve_post_deploy()` resolvia modais On Play de 1 botao e parava ao ver 3 botoes unicos consecutivos. No `HEAD`, ela parava imediatamente em qualquer botao unico, deixando o modal da OP13-086 para o loop principal, que em `in_main=True` tenta continuar via engine.

### Mudanca
- `scriptis_da_ia/bot_optcgsim.py`: restaurei `_resolve_post_deploy()` para clicar prompts unicos pos-deploy ate 2 vezes e parar no 3o botao unico estavel (= provavel End Turn), mantendo pass/counter em prompts de 2 botoes.

### Validacao
- `python -m py_compile scriptis_da_ia\bot_optcgsim.py`

### Proximo teste sugerido
- Rodar um teste curto, com simulador ja na tela de selecao de deck:
```
python scriptis_da_ia\bot_optcgsim.py --deck "Imu" --partidas 1 --timeout 90
```
- Esperado: apos `E(play:OP13-086)`, o bot deve resolver prompts On Play e nao travar/finalizar imediatamente por `[fim detectado]`.

---

## 2026-07-03 (53) - Claude
**Corrige bbox do OCR de prompt**

Problema: `PROMPT_TEXT_BBOXES` apontava para y=500-585/690, que captura
o texto do card preview (Saint Marcus Mars etc.) junto com o prompt.
OCR retornava lixo: `'<i 5 es ee oe = ye ee per wae Yom`.

Diagnosticado via `_debug_prompt_bbox/full.png`: caixa de prompt fica
em y≈615-673, x≈935-1270 (fundo bege, fundo-direita da tela).

Fix: `PROMPT_TEXT_BBOXES = [(930, 608, 1275, 682)]` — apenas a caixa
do prompt, sem o card preview acima.

`calibrar_prompt_bbox.py` atualizado com novos candidatos centrados
na posicao correta.

---

## 2026-07-03 (52) - Claude
**Fix DON apos play e fallback errado quando deploy falha**

### Problema identificado no log
- `[PLAY] _try_deploy_card=False` repetido para mesma carta (ex. OP14-096):
  engine propunha carta com custo > DON disponivel porque `gs.don_available`
  nao era decrementado apos play bem-sucedido anterior.
- Apos deploy falhar, bot caía direto no fallback `A` (ataca lider) em vez
  de tentar outra acao do engine.

### Fixes
1. **DON decrement apos play**: `gs.don_available -= played.cost` imediatamente
   apos `_try_deploy_card=True`. Imprime `[DON-N=M]`.
2. **`_action_once_key` agora inclui 'play'**: permite rastrear deploys falhos
   em `used_engine_actions`.
3. **Skip de play falho**: quando `once_key in used_engine_actions` para 'play',
   faz `continue` (engine propoe proxima acao) em vez de encerrar o turno.
4. **Fallback de deploy falho**: quando `_execute_engine_action` retorna False
   para 'play', adiciona codigo a `used_engine_actions` e `continue`; fallback
   de ataque so dispara quando nao ha mais acoes de play validas.

### Proximos itens
- OCR do prompt (`PROMPT_TEXT_BBOXES`) esta lendo area errada (retorna lixo).
  Calibrar as coordenadas com `calibrar_prompt_bbox.py`.
- [fim detectado] apos OP13-086 pode ser fim de jogo legitimo (On Play poderoso).
  Verificar se o jogo realmente termina ou se e timeout de animacao.

---

## 2026-07-03 (51) - Claude
**Prompts genéricos + Activate:Main**

### Mudancas
**sim_bridge.py — resolve_prompt_choice:**
- `_normalize_prompt()`: corrige OCR antes de parsear (Tras->Trash, Chose->Choose, Enemy->Opponent, "1 Cards"->"1 card", etc.)
- Novos padroes: "place on top/bottom", "look at", "add to hand", "up to N character", "life card"
- "choose 0/select 0" passa direto sem exigir "character" no texto
- Fallback explicito quando nao ha personagens (opp sem chars -> click_button)

**bot_optcgsim.py — _resolve_prompt_with_engine:**
- Sempre imprime OCR + intencao (antes so imprimia quando resolvia)

**bot_optcgsim.py — _execute_engine_action activate:**
- Imprime [ACT] code/type/clicked e buttons para diagnostico
- Se board_cards vazio e carta nao e LEADER/STAGE: faz rescan do campo antes de clicar
- Se nenhum botao apos clicar carta: deseleciona e retorna False (nao travar)

### Proximo passo
- Rodar partida e verificar se P[...] aparece em prompts e [ACT] em activate
- Se "activate" do engine nunca dispara, checar scoring em decision_engine.py
- Resolver [fim detectado] pos-End Turn (MAX_IDLE=50 ainda pode ser pouco)

---

## 2026-07-03 (50) - Claude
**4 fixes aplicados — bot joga e ataca via engine**

### Fixes desta sessão
1. **SelectDeck por teclado** (P1=True,P2=True): `_select_deck_dropdown` usa `Home`+`Down`×N+`Enter` em vez de OCR. Funcionou nos testes 24-27.
2. **attacked=True** apos engine attack: evita tentativa dupla via fallback A.
3. **DON_SYNC removido** apos play: log captura DON corretamente (sem sobrescrever com 0).
4. **gs.hand atualizado** imediatamente apos E(play): remove a carta jogada sem depender do log. Fix critico — engine repetia a mesma carta.
5. **idle_ticks=0** apos E(action) e apos End Turn: animacoes longas nao trigam fim detectado.
6. **Post-attack prompt handler**: apos E(attack), 0.8s + loop de 15x resolve counter/trigger do oponente.
7. **MAX_IDLE=50** (15s): aguarda animacoes On Play longas.

### Resultado (test27)
```
SelectDeck(P1=True,P2=True)
M[DON=2] → E(play:OP13-086) → E(attack:OP07-019) → .
[fim detectado]   <- pos-ataque, provavel fim de jogo ou trigger longo
```

### Problema residual: [fim detectado] apos primeiro ataque
Consistente nos testes 25-27. Pos-ataque, nao aparecem botoes por 15s.
Causas possiveis (a investigar):
- OP13-086 tem On Play que causa dano massivo → jogo acaba em turno 1 (correto?)
- Trigger de vida do P1 tem animacao > 15s (aumentar MAX_IDLE para 100?)
- Post-attack prompt handler resolveu prompts mas em seguida end-turn click
  causou estado inesperado no jogo

### test28: [fim detectado] logo apos Start
Estado do simulador provavelmente era de tela de resultado anterior.
Bot precisa que o simulador esteja na tela de selecao de deck ao iniciar.

### Proximo passo
- Checar o que OP13-086 faz (se faz dano em On Play, o jogo pode estar terminando corretamente)
- Se necessario: aumentar MAX_IDLE para 100 (30s) para trigger animacoes
- Garantir que o simulador reseta para a tela correta entre partidas (ou aguardar manualmente)

---

## 2026-07-03 (49) - Claude
**Engine jogando cartas: fix probe sem deploy + DON correto**

### Bug corrigido
O probe anterior deployava uma carta (gastando todo DON) e depois o `_read_don_active`
sobrescrevia o DON rastreado pelo log com 0. Engine sempre via `don=0` e nunca propunha plays.

### Fix em 2 partes
1. **`_probe_main_phase(x)`** (nova funcao): detecta Main Phase clicando carta e
   **cancelando** o prompt (C_BTN_MAIN), sem deployar nada. DON nao e gasto.
2. **Remove `_read_don_active` do probe**: o log ja captura corretamente o DON ganho
   via `[DON+N=M]`. Printa `[DON=N]` mostrando o valor real ao engine.

### Resultado (test23)
```
M[DON+1=1][DON+2=3][DON+2=5][DON=5]  <- engine ve 5 DON
[ENG] 7 acoes | hand=7 don=5 turn=4   <- 7 opcoes!
E(play:OP13-086)                       <- ENGINE JOGOU CARTA ✅
```

### Problema residual
Apos E(play:OP13-086) → [fim detectado]. Provavelmente On Play effect de OP13-086
gerou prompt que o bot nao tratou. `_resolve_post_deploy` tem 10x0.3s = 3s de janela;
se o prompt demora mais, o bot volta pro loop sem resolver.

### Proximo passo
- Investigar OP13-086 (qual efeito On Play?) e ver se _resolve_post_deploy precisa
  de mais iteracoes ou de um check no loop principal apos action_executed
- DON_SYNC apos engine play ainda usa _read_don_active (retorna 0 por OCR); avaliar
  se deve ser removido tambem (o log pode capturar Rest Don apos deploy)

---

## 2026-07-03 (48) - Claude
**Fix: engine play actions falhavam por DON desatualizado apos probe deploy**

### Causa raiz confirmada
Apos o probe (`_try_deploy_card` na deteccao de Main Phase), o jogo gastava DON mas
`gs.don_available` nao era decrementado. Engine via don=5, propunha plays, mas o jogo
rejeitava (`_try_deploy_card=False`) porque DON real = 0.

Confirmado no log de test20:
```
[PLAY] code=OP05-089 hand_x=212 vis=[..., ('OP05-089', 212)]
[PLAY] _try_deploy_card=False   <- jogo sem DON, engine nao sabia
```

### Fix implementado (`bot_optcgsim.py`)
1. **Probe**: apos deploy do probe, aguarda 0.4s e le DON real da tela via
   `_read_don_active(DON_P2_HOVER)` -> `gs.don_available = don_real`. Imprime
   `[DON_SYNC=N]` para debug.
2. **Engine play**: apos `E(play:...)` executado, le DON real da tela (mesmo mecanismo)
   antes de rodar o delta do log. Engine da proxima iteracao ve DON correto.

### Estado atual
- Engine propoe play e attack com DON/turno corretos
- `[DON_SYNC=N]` aparece no log apos cada deploy (probe e engine)
- Proximo passo: testar em partida real e confirmar `E(play:...)` executando com sucesso

---

## 2026-07-03 (47) - Claude
**Fix typos de regressao do Codex: pag.maouseDown/Up e amaount**

Codex (sessao 46) introduziu `pag.maouseDown()` e `pag.maouseUp()` em 3 lugares
(`_try_attack_leader`, `_try_attack_char`, `attach_don`) e `amaount` como nome de
variavel. Todos corridos para `mouseDown`/`mouseUp`/`amount` sem mudar logica.
Arquivo compila OK.

---

## 2026-07-03 (46) - Codex

**Bot OPTCGSim: selecao de deck validada, engine actions e limpeza ASCII**

### O que foi feito
- `bot_optcgsim.py` agora confirma P1/P2 no dropdown antes de iniciar a partida. Se a selecao visual nao bater com `--deck`, aborta e volta ao menu, evitando logs contaminados.
- `--timeout` foi exposto na CLI para testes curtos de automacao sem esperar partida completa.
- `_execute_engine_action()` passou a tratar tambem:
  - `activate` em leader/stage/personagem de campo
  - `attach_don` por drag do DON para leader/personagem
- No inicio da Main Phase, o bot volta a usar `full_scan(gs, opp_gs)` quando o bridge esta disponivel, para o engine ter mao/campo/DON.
- A condicao de chamada do engine deixou de depender de `hand_cards and gs.hand`; isso permite decisoes com campo/leader mesmo sem carta na mao.
- Adicionada trava local por turno para evitar repetir `activate`/`attack` da mesma carta quando OCR/log nao atualiza o estado rapido o suficiente.
- `bot_optcgsim.py` foi normalizado para ASCII para remover mojibake (`Ã`, `â`, `�`, etc.) que atrapalhava patches e revisao.

### Evidencias de teste
- `python -m py_compile scriptis_da_ia\bot_optcgsim.py scriptis_da_ia\optcg_engine\sim_bridge.py`
- `python scriptis_da_ia\bot_optcgsim.py --help`
- Testes manuais curtos com `--deck "Imu"` validaram:
  - `SelectDeck(P1=True,P2=True)`
  - log recente com `Imu` vs `Imu`
  - engine executando cartas reais, incluindo evento e `Bartholomew Kuma`

### Riscos / dividas
- A selecao do deck ainda depende de coordenadas e calibracao do scrollbar do dropdown do Unity. Agora falha fechado, mas ainda merece uma solucao mais robusta no futuro.
- A trava local de `activate/attack` e pragmatica. A solucao estrutural correta e o engine/modelo de turno entender "once per turn"/acao ja usada.
- `C_P2_STAGE = (765, 545)` e uma coordenada estimada; precisa validacao em partidas com stage/activate.
- `attach_don` foi implementado por drag visual, mas ainda precisa teste dedicado em partida.
- O `HANDOFF.md` antigo ainda contem mojibake em entradas anteriores; esta entrada nova ficou em ASCII para nao aumentar o problema.

---

## 2026-07-02 (45) - Claude

**Bot: fix modal On Play após deploy — `_resolve_post_deploy()`**

### Bug corrigido
`_handle_prompts()` saia imediatamente ao ver 1 botão (`else: return`). Quando uma carta tinha efeito On Play (ex: Electrical Luna OP08-036 "Rest 3 Don"), o modal ficava aberto indefinidamente. O bot ficava travado em `in_main=True` sem conseguir avançar.

### Fix em `bot_optcgsim.py`
- Nova função `_resolve_post_deploy()`: resolve botões pós-deploy com lógica de "consecutive single button counter"
  - 2 botões → clica C_BTN_MAIN (Pass/Counter)
  - 1 botão → clica (modal On Play) — mas para após 3 botões únicos consecutivos (= End Turn estável)
  - 0 botões → para
- `_try_deploy_card()` chama `_resolve_post_deploy()` em vez de `_handle_prompts()`
- `_handle_prompts()` inalterado (ainda usada em `_try_attack_*`)

### Resultado
`DA.DA.DA.DA.D` + "fim detectado" — 5 turnos, jogo encerra naturalmente.

### O que falta (itens restantes da sessão 44)
- Engine ainda raramente é usado (scan_hand após probe devolve [] se modal ainda abre) → engine path depende de hand_cards não-vazio
- Não ataca com personagens do campo, só com o leader
- `activate` e `don_attach` não implementados em `_execute_engine_action()`
- Probe tenta só x=107..247 (5 posições)

---

## 2026-07-02 (44) - Claude

**Bot: partida completa funcionando (5 turnos, DA.DA.DA.DA.DA.)**

### Bugs corrigidos esta sessão

1. **`_handle_prompts` clicava TOP em vez de MAIN** → trocado para C_BTN_MAIN (Pass/Skip) em todos os dois-botões durante jogo
2. **Engine `_generate_and_score_actions` travava infinitamente** → `choose_action()` em `sim_bridge.py` agora usa `threading.Thread(daemon=True)` com `t.join(timeout=4.0)` — retorna None em 4s sem bloquear
   - Tentativa com `ThreadPoolExecutor` falhou: o `with` block chama `shutdown(wait=True)` que trava junto com a thread presa
3. **`full_scan()` após deploy (~11s) causava atraso excessivo** → removida a chamada de `full_scan` imediatamente após deploy; bot usa `hand_cards=[], board_cards=[]` e o engine só é chamado se `hand_cards` não está vazio
4. **Segurança de loop infinito** → `actions_this_turn` + `MAX_ACTIONS_PER_TURN=6`: após 6 ações no mesmo turno encerra forçado (print "X")

### Resultado
Bot completa partida de ponta a ponta: `DA.DA.DA.DA.DA.` = 5 turnos de Deploy+Attack+EndTurn.
- Primeiro deploy na sonda da Main Phase (`D`)
- Ataca leader adversário (`A`)  
- Encerra turno (`.`)
- Detecta fim de partida → baixa log de combate → volta ao menu

### Estado atual
- `bot_optcgsim.py`: funcional, completa partidas
- `sim_bridge.py`: `choose_action()` com daemon thread (timeout 4s)
- Push pendente de HANDOFF

### O que falta / limitações conhecidas
- O engine é chamado apenas quando `hand_cards` não está vazio (nunca, pois removemos o full_scan após deploy) → bot joga só attack+endturn sem usar o engine de decisão
- Não ataca com personagens do campo, só com o leader
- Não implementa `activate` nem `don_attach`
- Probe da Main Phase tenta as primeiras 5 posições da mão (x=107..247); se nenhuma carta acessível estiver nesses slots, o bot não entra em Main Phase e apenas encerra o turno
- Side panel do simulador abre esporadicamente (causa desconhecida, não impede o bot de funcionar pois End Turn pixel ainda detecta corretamente)

---

## 2026-07-02 (43) - Claude

**Bot: log delta para rastrear estado sem rescan constante**

### Problema resolvido
Rescan completo via hover+OCR após cada ação levava ~10s e travava o simulador. Solução: scan completo UMA VEZ no início da Main Phase, depois só lê o painel de log (esquerda) para atualizar o estado incrementalmente.

### Mudanças em `bot_optcgsim.py`
- `HOVER_WAIT`: 0.65s → 0.30s (scan inicial mais rápido)
- `read_log_delta()`: OCR do painel de log (bbox 135,210,390,475), texto claro em fundo escuro (inverte antes do OCR), retorna só linhas novas desde última leitura
- `apply_log_delta(gs, opp_gs, lines)`: parseia linhas e atualiza GameState:
  - `[You] Deploy X [CODE]` → remove de gs.hand, adiciona em gs.field_chars
  - `[Opponent] Deploy X [CODE]` → atualiza opp_gs.field_chars
  - `[You] Draw N Card` → retorna True (precisa rescan parcial da mão)
  - `[You] X: Rest N Don` → gs.don_available -= N
  - `K.O. [CODE]` → remove do campo correto
  - `hit for N damage` → atualiza gs.life ou opp_gs.life
- `full_scan()`: escaneia mão + campo P2 + campo P1 + DON — chamado UMA VEZ por Main Phase
- `scan_opp_board()`: novo, escaneia campo do P1 para estado inicial do oponente
- Loop principal: após cada ação, chama `read_log_delta()` + `apply_log_delta()` em vez de rescan completo. Só rescaneaia mão quando `apply_log_delta` retorna True (sacou carta)

### Estado atual
Código commitado, push pendente de atualizar este HANDOFF. Ainda não testado com simulador aberto nesta sessão.

### O que falta
- Testar o log delta rodando uma partida real e ver se o OCR do painel de log funciona bem (fundo escuro, texto pequeno)
- Calibrar bbox do log se necessário
- Implementar ações `activate` e `don_attach` em `_execute_engine_action()`

---

## 2026-07-02 (42) - Claude

**Bot OPTCGSim com engine real integrado**

### Contexto
Bot para jogar partidas Solo v Self no OPTCGSim usando o `decision_engine.py` real para decisões (não heurísticas).

### `scriptis_da_ia/bot_optcgsim.py` (reescrito completo)
- **Seleção de deck**: `--deck NOME` lista decks de `E:\Games\...\Decks\*.deck`, menu interativo se não passado
- **Engine integrado**: cria `OPTCGMatch(deck_tuple, deck_tuple)`, usa `state_b` como P2 (nós)
- **Leitura de estado** via hover+OCR:
  - `scan_hand()`: hover em y=648, x=107..410, step=35 → OCR nome/custo/power
  - `scan_board_p2()`: hover nas posições da character area P2 → OCR
  - `_read_don_active(hover_pos)`: badge "N(M)" → ativo = N-M
  - `_read_counter_badge(hover_pos)`: lê número de qualquer badge (deck, mão oponente)
- **Fluxo Main Phase**: detecta Main Phase clicando carta (se Deploy aparecer = Main Phase), sincroniza com `bridge.sync_hand/sync_field`, chama `bridge.choose_action()`, executa via `_execute_engine_action()`
- **Execução de ação**: `play` → clica carta na mão; `attack` → drag líder/char até P1; outros tipos retornam False (fallback para ataque com líder + End Turn)

### `scriptis_da_ia/optcg_engine/sim_bridge.py` (sem mudança nesta sessão)
- `choose_action(gs, opp_gs, match)` → engine decide melhor ação

### Posições mapeadas via hover (1366×768):
- DON P2: hover (495, 634) → badge "N(M)"
- DON P1: hover (865, 100) → badge "N(M)"
- Deck P2: hover (480, 545) → badge count = 6
- Deck P1: hover (870, 200) → badge count = 3
- Trash P2: hover (855, 640) → mostra preview topo do trash (Slam Gibson OP12-117)
- Mão P1 count: hover (250, 90) → badge count
- Life P2/P1: posições ainda não mapeadas precisamente (LIFE_P2_HOVER=(480,460) e LIFE_P1_HOVER=(463,210) são estimativas)

### O que falta:
- Mapear posições precisas de life P2 e P1 (o jogo estava turn 19 com P2 talvez com 0 vidas)
- Implementar ações `activate` e `don_attach` em `_execute_engine_action()`
- Testar bot rodando de verdade em uma partida do início

---

## 2026-07-02 (41) - Claude

**Importer de logs do simulador OPTCG (AutoSaved .log) → banco de logs**

### Contexto
Usuário tem simulador Unity local (`OPTCGSim.exe`) em `E:\Games\OnePieceSimulador\Builds_Windows\`.
Pasta `CombatLogs/AutoSaved/` tinha 31 logs `.log` de partidas reais humano vs humano — dados não importados ainda.

### `scriptis_da_ia/importar_logs_autosaved.py` (novo)
Parser de `.log` do AutoSaved → formato `logs/parsed/*.json` + atualiza `logs/index.json`.

**Formato do `.log` (texto com prefixo [jogador]):**
- Setup: líderes, quem escolheu 1º/2º, mão antes/depois do mulligan, se fez mulligan
- Ações: Deploy, Attach Don, attacking, hit for N damage, Concedes!
- Fim de turno: `End Turn` seguido de snapshot completo de ambos os jogadores
- Linhas `RZ1|...`: estado interno de posição de cartas (ignorado pelo parser)

**Detecção de vencedor (dois caminhos):**
1. `[player] Concedes!` → o outro jogador vence
2. Rastreamento de vida em tempo real via snapshots + "X hit for N damage" onde X é líder:
   - quando `tracked_life[victim] == 0` e recebe hit → hit fatal → outro jogador vence

**Formato de saída:** mesmo padrão que os JSONs do simulador, com campos extras:
- `meta.mulligan_p1/p2`: `{before: [...], after: [...], took_mulligan: bool}`
- `meta.source: "autosaved_log"`, `meta.original_file`

**Resultado:** 26/31 importados (5 ignorados: 4 com líderes não identificados por encoding, 1 muito curto). 
Vencedor detectado em ~18/26 (8 foram partidas abandonadas por desconexão sem "Concedes!" e sem hit fatal detectado).

### Próximos passos óbvios
- Jogar mais partidas no simulador → `CombatLogs/AutoSaved/` acumula → rodar importer
- `python importar_logs_autosaved.py "E:/Games/OnePieceSimulador/Builds_Windows/CombatLogs/AutoSaved"` (já pula logs existentes)
- Bot de decision support: monitorar o `.log` ativo em real-time e mostrar recomendação da IA no terminal

---

## 2026-07-02 (40) - Claude

**Validação de hand scoring via simulação (#1 #2) — endpoint /hand-stats + UI win rate brackets**

### Backend — `scriptis_da_ia/hand_scorer.py` (novo)
- Port Python da lógica `avaliarMao()` do TypeScript: `score_hand()`, `detect_archetype()`, `searcher_quality()`
- Mesmo sistema de modificadores por arquétipo (rush/aggro/control/ramp/midrange)
- `card_to_handcard()`: converte Card do engine → HandCard para scoring
- Detecta searcher via texto do card (look at the top / search your deck / look at up to)

### Backend — `scriptis_da_ia/api.py`
- Novo endpoint `POST /hand-stats` (aceita lista de CardEntry igual ao `/analyze`)
- Cria `InstrumentedMatch(OPTCGMatch)`: subclasse que captura `_opening_hand_a/b` pós-setup
- Carrega deck do usuário via `load_deck()` e até 8 oponentes de `decklists_raw.csv`
- Roda ~80 partidas (n_per_opp × len(opponent_pool)), alternando 1º/2º jogador
- Para cada partida: score a mão real capturada → registra se ganhou
- Agrega em 5 brackets fixos (Ruim/Abaixo da média/Médio/Bom/Excelente)
- Retorna `{archetype, n_games_ran, overall_win_rate, avg_hand_score, score_brackets, mulligan_threshold}`
- Threshold = max_score do último bracket com win_rate < 0.45

### Frontend — `src/app/analysis/page.tsx`
- Interfaces `HandStatsBracket` e `HandStats` declaradas ao nível de módulo
- Estado `handStats` + `handStatsLoading`; fetch `POST /hand-stats` no useEffect de análise
- Spinner "Simulando partidas vs decks de meta..." enquanto carrega (~30s)
- Seção "🎲 Validação por Simulação" (entre melhores mãos e plano de turnos):
  - Cards resumo: Win Rate Geral · Score Médio de Mão · Threshold de Mulligan
  - Barra por bracket: cor verde/amarelo/vermelho pelo win rate (≥55% / 45-55% / <45%)
  - Banner "limite mulligan" no bracket de threshold
  - Dica textual quando threshold está definido
- Fix: badge "6 cartas" do 2º jogador corrigido para "5 cartas"
- Timeout de 120s no fetch (partidas podem levar ~30-60s)

### Estado atual
- Zero erros TypeScript + ESLint (apenas warnings de `<img>` pré-existentes)
- `/hand-stats` funciona localmente; endpoint síncrono (~30-60s para 80 partidas)
- Feature #3 (turn plan real da simulação) decidido usar `/leader-stats` já existente em vez de dados de IA (dados humanos = ground truth mais confiável)

---

## 2026-07-02 (39) - Claude

**Plano de turnos em 2 colunas (1º/2º jogador) + heurística de vida como recurso**

### Frontend — `src/app/analysis/page.tsx`
- `gerarPlano()`: novo tipo `PlanoTurno` com `sugestao1/sugestao2` e `cartas1/cartas2` separados por posição
- Layout do plano em grid 2 colunas: esquerda = 1º jogador (laranja), direita = 2º jogador (azul)
- Cada turno tem sugestão e cartas específicas para a faixa de DON de cada posição
- `cartasLog()`: prioriza cartas dos logs reais para a faixa de custo de cada turno

### Heurística: vida como recurso (dica gameplay #1)
- Mão com 3+ counters e nenhuma ofensiva → penalidade "brick funcional" (`-25 × penT1Mult`)
- Deck aggro/rush com 3+ counters → penalidade extra de -12 (excesso de defesa passiva)
- Fundamentado na regra: "vida = recurso, não HP — em aggro você quer offensiva, não counters"

### Referência salva (local only, .gitignore)
- `_referencias/dicas_gameplay_optcg.md`: 7 dicas de gameplay com impacto mapeado nas heurísticas

---

## 2026-07-02 (38) - Claude

**Plano de turnos: DON!! correto + endpoint /leader-stats com dados reais de log**

### Backend — `scriptis_da_ia/api.py`
- Novo endpoint `GET /leader-stats?leader_name=<nome>` (busca parcial, case-insensitive)
- Lê `logs/index.json`, filtra logs onde o líder aparece (p1 ou p2)
- Para cada log encontrado, agrega ações `type=play` por turno do jogador com esse líder
- Retorna `{total_games, turns: {"1": [{card_code, card_name, count, pct}], ...}}`
- Usado pelo front para priorizar cartas reais de log no plano de turnos

### Frontend — `src/app/analysis/page.tsx`
- `gerarPlano()` refatorado: novo tipo `PlanoTurno` com `don1`/`don2` separados
- Curva de DON!! correta: 1º → T1=1, T2=3, T3=5, T4=7 DON!!; 2º → T1=2, T2=4, T3=6, T4=8
- Cartas do plano: se `leaderStats` tem dados para o turno, prioriza cartas mais jogadas nos logs; senão usa análise do deck
- Novo `useEffect` busca `/leader-stats` para o líder do deck ao carregar
- Estado `leaderStats` + badge "✦ N partidas reais no banco" quando API retorna dados
- UI do plano: bloco de DON split em dois (laranja=1º / azul=2º)
- Texto do subtítulo exibe a curva completa de ambas as posições

### Estado atual
- Zero erros TypeScript; servidor 3000 no ar
- `/leader-stats` funciona localmente; precisa do deploy Railway para o front em produção consumir

---

## 2026-07-02 (37) - Claude

**Fix /analysis: melhores mãos por posição (1º/2º jogador) + arquétipo do deck**

### Curva de DON corrigida
- 1º jogador: T1=1 DON (custo≤1), T2=3 DON (custo 2-3), T3=5 DON (custo 4-5)
- 2º jogador: T1=2 DON (custo≤2), T2=4 DON (custo 3-4), T3=6 DON (custo 5-6)
- Ambos compram 5 cartas no mulligan (o +1 do 2º é o draw do T1 dele, não da abertura)

### Separação 1º / 2º jogador
- UI exibe duas seções distintas (laranja / azul) com 3 melhores mãos cada
- Counter 2k vale +20 pra 2º jogador (vai levar 1º hit de qualquer jeito) vs +16 pra 1º
- 2 searchers no 2º jogador recebe bônus extra +12 (ramp de 2 DON T1 = joga + busca)

### Arquétipo detectado via heurística client-side
- `detectarArquetipo()`: classifica `rush / aggro / control / midrange / ramp` pela composição
  - rush: ≥28% cartas com [Rush]
  - aggro: ≥14% [Rush] + avg custo ≤3.5
  - control: ≥18% [Blocker] + avg custo ≥4, ou avg custo ≥4.5
  - ramp: ≥12% cartas com efeito de adicionar DON
- `getArqMod()`: retorna modificadores de scoring (t1Bonus, rushBonus, counter2kMult, etc.)
- Arquétipo exibido na UI ao lado do subtítulo da seção de mãos

### Outros ajustes de scoring
- Searcher escala com `calcSearcherQuality()`: % de bons alvos no deck
- Cartas +2k excluídas da contagem de T1/T2/T3 (não se joga counter no campo)
- Penalidade para mão toda custo 1 (sem gasolina mid-game): -15pts
- Bomba do deck: penalidade por mão pesada escala com `mod.bombPenMult` (ramp/control toleram mais)

### Estado atual
- `/analysis`: zero erros TypeScript, servidor rodando na 3000
- Próximo: testar com diferentes decks (aggro vs control) para validar os modificadores de arquétipo

---

## 2026-07-02 (36) - Claude

**Fix /analysis: scoring de mão com cobertura T1/T2/T3, bomba do deck, brick preciso**

- `avaliarMao`: pontos por jogada em T1(+28), T2(+22), T3(+12) + bônus curva completa T1→T2→T3.
- `getDeckBombId`: identifica carta mais cara/poderosa do deck como "bomba".
- Ter 1 bomba na mão = +8pts (sabe o que está construindo), 2+ = -20pts cada.
- `isEventCounter`: eventos com `counter_amount > 0` contam como defesa.
- Brick = sem jogada T1 nem T2-T3 E sem defesa nenhuma (counter 2k, 1k ou evento-counter).
- `gerarMelhoresMaos` passa `bombId` para `avaliarMao`.

---

## 2026-07-02 (35) - Claude

**Fix /analysis: melhores mãos, dependência, brick e labels**

- `avaliarMao`: diminishing returns — 1 searcher=+30, 2=+3, 3+=-18/cada. Evita mãos com 3 cópias da mesma carta no topo da simulação.
- `isSearcher()`: nova função com detecção mais precisa ("search your deck" / "look at the top...add" / "look at up to"), descarta "add up to" genérico que pegava cartas de vida.
- `simularMaos`: dependência agora conta mãos únicas (Set por hand) em vez de slots. Resultado: % de mãos que viram a carta, não proporção de cópias.
- Brick: `!temLow4 && !temCounter2k` (sem carta ≤4 E sem counter 2k), antes ignorava mãos pesadas que tinham 1 counter.
- Label tabela probabilidade: "Chance de Tirar a Peça se Não Veio na Mão".
- Dependência renomeada para "Frequência na Abertura".

---

## 2026-07-02 (34) - Claude

**Fix + UX: deck builder estável, borda dourada no leader**

- Fix: `card_color is null` em 4 pontos do `/deck/page.tsx` → `(card_color || '').split(...)`.
- UX: imagem do leader ganha `border-2 border-yellow-400` + `shadow glow` dourado.
- Fix tamanho: `w-22 h-31` (classes inexistentes no Tailwind) → inline style `88×124px`.

---

## 2026-07-02 (33) - Claude

**Fix urgente — Deck Builder crashava com `card_color is null`**

Cartas com `card_color = null` no banco causavam TypeError em 4 lugares no
`/deck/page.tsx` onde `.split()` era chamado diretamente sem null check.
Fix: `card.card_color.split(...)` → `(card.card_color || '').split(...)` nos 4 pontos
(validação de cor, badge da carta no resultado da busca, barra de cor do leader, badges do leader).

---

## 2026-07-02 (32) - Claude

**Feito — Melhorias de front-end (/simulate, /analysis, /meus-decks)**

### `/simulate`
- Ao abrir sem `?id=`, mostra picker inline com grid de decks do usuário (antes: erro "Nenhum deck selecionado").
- Botão "🎬 Replay direto" disponível na seção de configuração, sem precisar simular antes.

### `/analysis`
- Skeleton animado (`animate-pulse`) enquanto a API Python carrega arquétipo/sinergias/coesão.
- Aviso amarelo se a API falhar ou não retornar resultado.
- Botão "🎯 Simular este deck" ao final da página, ligando para `/simulate?id=`.

### `/meus-decks`
- Fix: `w-26 h-34` não são classes Tailwind padrão — substituídas por `style={{ width: '88px', height: '124px' }}`.
- Botão duplicar deck (⧉) que clona o deck com sufixo "(cópia)" via insert no Supabase.
- Botões de ação passam de `text-base` para `text-sm` para melhor proporção.

Build `npx next build` + `npx tsc --noEmit`: zero erros.

**Estado:** front funcional, motor em 87% top1-kind.

**Próximos passos:** decidir próxima fatia — mais logs, tuning de heurísticas, ou contrato de API para integrar motor com front.

---

## 2026-07-02 (31) - Claude

**Feito — +3 logs ao banco + fix de slug com caracteres ilegais**

Adicionados 3 logs novos ao banco (`logs/{raw,parsed,decks}/` + `index.json`):
- `Krieg-RG_x_Marshall.D.Teach-B_2026-07-02T00.16.32` (12 turnos, Karlmalone wins)
- `Krieg-RG_x_Brook-GB_2026-07-02T00.33.15` (12 turnos, Karlmalone wins)
- `Eustass.Captain.Kid-Y_x_Sabo-RB_2026-07-02T00.48.19` (11 turnos, TaxiCab wins)

**Fix `parse_combat_log.py`:** `_leader_slug` agora remove chars ilegais em filesystem
(`"`, `'`, `/`, `\`, etc.) do nome do líder antes de montar o slug. Necessário para
`Eustass "Captain" Kid` — as aspas duplas causavam `WinError 123` no `shutil.copy2`.

**Métricas após adição dos 3 logs (10 logs totais, 134 turnos):**
- top1-kind: **117/134 (87%)** — mantém acima do bar de 85%.
- 2 novos logs perfeitos (Brook e Marshall), Kid/Sabo tem 2 divergências no T7
  (humano ativa OP12-117 antes de jogar; comparador vê só 1ª ação).

**Próximos passos:**
- Fechar contrato de saída para o front (endpoint `/simulate` → resumo de decisões,
  motivo da jogada, replay visual). Ver TODO.md.

---

## 2026-07-02 (30) - Claude

**Feito — Fatia A: diagnóstico completo + fixes de score**

Métricas antes: top1-kind 86/99 (87%). Depois: **87/99 (88%)**.

Divergências analisadas turno a turno em todos os 7 logs. Categorias:

**Corrigidas:**
- `_make_card`: `data.get('type', 'CHARACTER')` → `data.get('type') or 'CHARACTER'`
  para tratar type=None no DB (afetava Five Elders OP13-082 e outros da coleção 13).
- `_score_play_action`: EVENT com `ko opp_stage` sem stage no campo do oponente → -120.
  `Never Existed` deixou de competir no T9 do Nami/Imu; `activate Empty Throne` subiu.
- `_score_play_action`: CHARACTER vanilla fraca (custo≤2, power≤3000, sem efeito/blocker)
  no early (turno pessoal ≤2) → -60. Humanos passam em vez de gastar 1 DON em vanilla.

**Divergências restantes (aceitáveis):**
- T11-T15 Nami/Imu: campo muito cheio no mid-game; snapshot do turno anterior
  não reconstruiu corretamente o estado de 5+ engines ativados. Bug do comparador,
  não do motor.
- Gecko Moria T5: humano ataca com opp_life=3 em vez de jogar carta. Priority LETHAL
  já existe mas o Turn Planner não estava priorizando no estado exato desse turno.
- Marshall/Lucy 2 turnos: ordering dentro do turno (humano ataca primeiro, depois joga);
  o comparador só vê a 1ª ação — divergência de método de comparação, não de motor.
- Jinbe vs Ace T1: Leo (custo 1, passive immunity) — humano passa; fix de vanilla
  não cobre por causa do efeito passive. Específico de estratégia do deck.

**Conclusão da Fatia A:**
Motor está em 88% top1-kind. As divergências restantes não são bugs corrigíveis sem
sobrecorrigir (risco de piorar outros casos). Barra de aceite atingida.

**Próximos passos:**
- Criar contrato de saída estável para o front (análise do deck, replay/partida, resumo
  de decisões, explicação curta do motivo da jogada da IA).
- Ou: adicionar mais logs ao banco e re-medir antes de mover pro front.

---

## 2026-07-02 (29) - Claude

**Feito — Fatia B: defesa situacional + fix de counter chunks revelados**

- **`should_use_blocker`**: com 4 vidas e `opp_life <= 2`, agora bloqueia atacantes
  com poder >= poder do líder. Antes nunca bloqueava com 4 vidas, mesmo sob pressão
  de lethal iminente.
- **`should_use_counter`**: com 4 vidas e `opp_life <= 2`, ratio cai de 2x para 1.5x.
  Afrouxar o threshold quando oponente está próximo de ganhar reflete o comportamento
  humano observado nos logs sem depender de padrões por líder (base de 7 partidas
  é insuficiente para isso).
- **`opp_counter_chunks_for_lethal` (bug fix)**: o Codex havia quebrado o teste
  `can_lethal respeita counters revelados` ao assumir `[2000] * unknown_hand_size`
  para slots ocultos. Restaurado para "ocultos = ignora (0), revelados = valor real" —
  contrato correto para cálculo de lethal garantido. Todos os smoke tests passam.
- **`_score_activate_main`** (mudança do Codex, agora commitada): avalia melhor alvo
  elegível da mão quando o efeito é `play_card`. Empty Throne sobe de score 95 para
  ~180, competindo melhor com jogar carta forte da mão.
- Revisão dos commits do Codex (sess. 28): mudanças sólidas no geral. Ponto de atenção:
  bonus de padrões humanos (`_human_pattern_bonus`) com 7 partidas é frágil — monitorar
  se divergências sobem com mais logs.

**Estado atual:**
- Fatia A (tuning Imu/Empty Throne): feita pelo Codex (sess. 28), métricas 43/99 top1-exact.
- Fatia B (defesa/counter): feita agora.
- Smoke tests: todos passando.

**Próximos passos:**
1. Decidir se motor está bom o suficiente para o front (barra de aceite: top1-kind >= 85/99).
2. Se sim: criar contrato de saída estável para o front consumir (análise, replay, decisões, explicação).
3. Se não: identificar os 15/99 turnos em que top1-kind ainda diverge e checar se são
   bugs de regra (corrigir) ou heurística (tunar mais).

---

## 2026-07-02 (28) - Codex

**Feito - padroes humanos de pilotagem + ajuste leve no Turn Planner:**

- Adicionado `scriptis_da_ia/audit_human_patterns.py` para extrair padroes humanos dos logs parseados: ordem de acoes, n-grams por leader, acoes antes do ataque e respostas defensivas/counter.
- Gerado `scriptis_da_ia/human_patterns.json` a partir de 7 logs humanos: 99 turnos, 487 acoes e 95 eventos defensivos/counter.
- `decision_engine.py` agora carrega `human_patterns.json` quando disponivel e aplica bonus leve/capado para `play`, `activate` e `attack` vistos em padroes humanos do leader.
- `compare_vs_human.py` ganhou `--summary`, `--top-k`, normalizacao de ataques por `attacker_code`, comparacao `exact/kind/miss`, DON por turno pessoal e inferencia de Stage ativado (ex.: `The Empty Throne`) no snapshot reconstruido.
- Importados 4 logs humanos novos para `scriptis_da_ia/logs/{raw,parsed,decks}` e atualizado `logs/index.json`.
- `parse_combat_log.py` ajustado para remover sufixo `.log` de timestamps vindos de arquivos `.log.txt`.
- Validacao leve: `python -m py_compile scriptis_da_ia\optcg_engine\decision_engine.py scriptis_da_ia\compare_vs_human.py scriptis_da_ia\audit_human_patterns.py scriptis_da_ia\audit_decision_quality.py scriptis_da_ia\parse_combat_log.py`.
- Metricas atuais do comparador: `top1 exact 41/99`, `top1 kind 84/99`, `top5 exact 87/99`, `top5 kind 96/99`.

**Proximo passo sugerido:**

Tunar prioridade de engines recorrentes (Imu/Five Elders/The Empty Throne) versus jogar carta forte da mao, agora que o comparador ja reconstrui Stage e DON de forma menos contaminada.

---

## 2026-07-01 (27) - Codex

**Feito - auditoria interna do Turn Planner + lethal com DON anexavel:**

- Novo `scriptis_da_ia/audit_decision_quality.py` para auditar o motor, nao logs humanos.
- `decision_log` agora registra decisoes do Turn Planner: contexto, top imediato, candidatos, escolha final, valor simulado e `win=X/N`.
- `_simulate_sequence` deixou de usar `1e9` como valor terminal bruto; agora usa `SIMULATED_WIN_SCORE = 50000.0`, evitando que `win=1/6` esmague linhas estaveis.
- `_score_activate_main` trata efeitos tipo Imu (`trash 1` + `draw 1`) como filtragem, nao vantagem liquida de carta; isso reduziu activate cedo de score ~120 para 10/45.
- `can_lethal_this_turn()` agora considera distribuicao de DON disponivel entre ataques, mantendo defesa conservadora com blockers/counters.
- `smoke_test.py` ganhou cobertura para lethal com DON anexavel e preservou o caso de counters revelados com DON=0.
- Validacao: `python -m py_compile ...`, `python scriptis_da_ia\smoke_test.py` e `python audit_decision_quality.py --n 10 --seed 42 --examples 8` passaram.

**Proximo passo sugerido:**

Rodar `audit_decision_quality.py --n 50 --seed 42 --examples 12` e olhar os blocos restantes: overrides grandes e ataques em vida 0 com `win=0/N`.

---

## 2026-07-01 (26) - Codex

**Feito - compare_vs_human corrigido + falso lethal score removido:**

- `scriptis_da_ia/compare_vs_human.py` agora usa snapshot aproximado de inicio do turno para comparar IA vs humano.
- O snapshot parseado continua sendo pos-turno; por isso o comparador usa o turno anterior + carta comprada no turno atual.
- T1 de Nami-BY x Imu-B deixou de acusar falso positivo: IA agora prefere jogar `Saint Shalria`, nao ativar Imu.
- `scriptis_da_ia/optcg_engine/decision_engine.py` nao da mais score `10000` para atacar leader com vida 0 quando `can_lethal_this_turn()` diz que o lethal nao e garantido.
- Revalidado nos 3 logs parseados: os scores falsos `9900/9920` sumiram; score alto sobrou apenas em lethal real.
- Validacao: `python -m py_compile scriptis_da_ia\compare_vs_human.py scriptis_da_ia\optcg_engine\decision_engine.py` e `python scriptis_da_ia\smoke_test.py` passaram.

**Proximo passo sugerido:**

Auditar os turnos em que Imu ainda prefere `activate` cedo, agora que a regua do comparador esta menos contaminada.

---

## 2026-07-01 (25) - Claude

**Feito — bug crítico no parser corrigido + 3º log adicionado:**

### Bug: parser não capturava ataques, bloqueios nem counters

Formato real do log: `["CODE">DisplayName]` (fecha com `">NAME]`)
Regex antigo esperava: `["CODE"]` (fecha com `"]`)

Resultado: zero ataques capturados em todos os logs anteriores. Corrido:
- `RE_ATTACK`, `RE_BLOCKS`, `RE_DISCARD`, `RE_EFFECT`, `RE_ATTACH` atualizados
- `RE_ATTACK` agora captura também o `attacker_code` (grupo 3)
- `result=None` em ataque sem "Attack Fails" → fechado como `'hit'` ao iniciar próximo ataque ou ao fim do turno
- Logs antigos re-parseados: 40 ataques agora capturados na partida Nami vs Imu (antes: 0)

### Diagnóstico do compare_vs_human após correção

Divergências falsas eliminadas: o humano SIM atacava nos turnos "sem ação". O estado de fim-de-turno (pós-ação) era usado como estado inicial — IA via characters ativos quando já tinham atacado. Divergências reais identificadas:
- **T01**: IA prefere activate do Imu (score 103) vs jogar Shalria (custo 1). Com 1 DON são mutuamente exclusivos — IA provavelmente supervaloriza activate no early.
- **T03**: IA rankeia activate como top, não vê a sequência jogar+ativar+atacar como um todo (Turn Planner vê só 1ª ação do turno).
- **T07/T17**: IA prefere activate, humano jogou carta — pode ser ordering issue do Turn Planner.

### 3º log adicionado

Imu-B vs Monkey.D.Luffy-BP (Sebs#6211), 17 turnos. Partida rica: Saturn debuffando Boa Hancock -2000, Gol D. Roger buffando Luffy, counters com Nami/Usohachi, The Empty Throne ativo todo turno. 41/50 do Imu, 30/50 do Luffy.

**Banco atual:** 3 partidas (Teach-BY×Lucy-RB, Nami-BY×Imu-B, Imu-B×Luffy-BP)

**Próximos passos prioritários (anotados no TODO):**
1. `compare_vs_human.py`: usar snapshot do turno ANTERIOR como estado inicial (hoje usa fim do turno atual → falsos positivos onde IA "quer atacar" chars que já atacaram)
2. `_score_activate_main`: penalizar quando campo vazio e DON ≤ 2 (IA prefere activate a jogar carta no T01 com 1 DON — mutuamente exclusivos)

---

## 2026-07-01 (24) - Claude

**Feito — compare_vs_human.py: compara IA vs humano turno a turno**

Script novo `scriptis_da_ia/compare_vs_human.py`:
- Lê um JSON de partida parseado (`logs/parsed/`)
- Para cada turno, reconstrói `GameState` (mão, campo, trash, vida, DON) a partir do snapshot
- Roda `_generate_and_score_actions` do Turn Planner no estado reconstruído
- Mostra: o que o humano fez vs top 8 ações da IA por score
- Marca `*** DIVERGENCIA` quando IA e humano escolheram diferente

Uso:
```
python compare_vs_human.py logs/parsed/<arquivo>.json
python compare_vs_human.py logs/parsed/<arquivo>.json --player Nome --no-state
python compare_vs_human.py logs/parsed/<arquivo>.json --turn 7
```

**Primeiros achados (partida Nami-BY x Imu-B):**
- T05, T09, T11, T13, T15: humano passou, IA queria atacar (score 470–585) — pode ser IA super-agressiva ou humano guardando DON para counter
- T01, T03: IA prefere `activate` do líder Imu antes de jogar carta — humano preferiu desenvolver campo
- T17: IA prefere activate, humano jogou Warcury — provavelmente IA certa (activate tem mais valor no estado terminal)

**Próximo passo:** auditar turno a turno quais divergências são bug de heurística vs decisão legítima do humano. T05 é o candidato mais óbvio (humano não atacou com field inteiro e vida baixa).

---

## 2026-07-01 (23) - Claude

**Feito — 2ª partida adicionada ao banco de logs:**

- Partida: Jack#5459 (Nami-BY, OP11-041) vs Karlmalone#2854 (Imu-B, OP13-079)
- 17 turnos, Karlmalone foi primeiro e perdeu
- Deck Imu: 42/50 cartas vistas (shell OP13 completo — Five Elders + quatro arcanjos)
- Deck Nami: 29/50 (partida curta)
- Arquivos: `Nami-BY_x_Imu-B_2026-07-01T14.22.50.{log,json}`

**Banco atual:** 2 partidas indexadas (Teach-BY×Lucy-RB, Nami-BY×Imu-B)

---

## 2026-07-01 (22) - Claude

**Feito — roadmap de análise estatística registrado no TODO:**

Adicionado ao TODO o plano de uso do banco de logs para estatísticas e tuning da IA:
- Win rate por matchup (líder × líder)
- Curva de vida por turno
- Deck popularity por líder
- Comparação IA vs humano: snapshot do log → engine decide → compara com jogada real

Nenhuma mudança de código nesta sessão.

---

## 2026-07-01 (21) - Claude

**Feito — nomes de arquivo dos logs usam lider+cor em vez de timestamp puro:**

- Adicionadas funções `_color_abbrev`, `_leader_slug`, `_match_slug` ao `parse_combat_log.py`
- Busca a cor do líder em `cards_rows.csv` (campo `card_color`)
- Converte cor para abreviação na ordem canônica OPTCG (R, G, B, P, B, Y): "Black Yellow" → "BY", "Blue Red" → "RB"
- Nome do líder limpo: remove sufixo " (NNN)", colapsa espaços em ponto, remove pontos duplos
- Arquivos agora se chamam `Marshall.D.Teach-BY_x_Lucy-RB_2026-07-01T12.46.16.{log,json}`
- Decks: `Marshall.D.Teach-BY_2026-07-01T12.46.16.json`, `Lucy-RB_2026-07-01T12.46.16.json`
- `index.json` ganhou campo `friendly_name` e `slug` em p1/p2
- `list_db` atualizado para exibir slugs amigáveis
- Banco re-populado com a partida Teach vs Lucy já no novo formato

**Pendências conhecidas:**
- Próximo passo: dado snapshot do log real, rodar engine e comparar decisão IA vs humano
- [B] handlers sem log: look_top_deck, negate_effect, activate_trash_event_main, lock_opp_don
- Frontend (deferred até motor estar satisfatório)
- Supabase service_role exposta no .env.local — rotacionar antes de deploy público

---

## 2026-07-01 (20) - Claude

**Feito — parse_combat_log.py com reconstrução de decks e banco de partidas:**

### parse_combat_log.py — extensão com deck reconstruction + DB

Adicionadas ao script existente:
- `reconstruct_decks()`: reconstrói deck de cada jogador a partir dos snapshots (contagem máxima simultânea de cada carta) + eventos de draw. Remove o código do líder. Exibe `N/50 cartas vistas` e lista com counts.
- `add_to_db()`: copia o `.log` para `logs/raw/`, salva JSON parseado em `logs/parsed/`, salva JSON dos decks em `logs/decks/`, atualiza `logs/index.json` com metadados da partida.
- `list_db()`: lista todas as partidas indexadas.
- Flags CLI: `--add-to-db` e `--list-db`.
- Testado com partida Teach vs Lucy: 37/50 e 45/50 cartas vistas, banco criado corretamente.
- Estrutura de pastas criada: `scriptis_da_ia/logs/raw/`, `logs/parsed/`, `logs/decks/`.

**Uso:**
```
python parse_combat_log.py partida.log --summary --add-to-db
python parse_combat_log.py --list-db
```

**Pendências conhecidas:**
- Próximo passo: dado um snapshot do log real, rodar o engine e comparar decisão da IA com o que o humano fez → divergências concretas para tunar heurísticas
- Deck reconstruction chega a ~45/50 cartas em partidas longas; decks curtos ficam incompletos (inerente ao método)
- [B] handlers sem log: `look_top_deck`, `negate_effect`, `activate_trash_event_main`, `lock_opp_don`
- Frontend (deferred até motor estar satisfatório)
- Supabase service_role exposta no `.env.local` — rotacionar antes de deploy público

---

## 2026-07-01 (19) - Claude

**Feito — 6 fixes de heurística + parser de combat log do simulador oficial:**

### Fixes no decision_engine.py / card_effects_db.json

1. **`activate_main` vira ação competitiva no Turn Planner** (commit b1ea2f6): Em vez de sempre disparar no início do turno, `_activate_main_effects` foi removido do loop e substituído por entradas `('activate', src, ...)` no `_generate_and_score_actions`. Novo método `_score_activate_main` pontua o benefício vs custo. A IA agora compara "ativar líder (score 120) vs jogar Five Elders (score 190)" e escolhe a ordem certa. `_remap_action` e `_apply_action` atualizados.

2. **`_score_play_action` valoriza `play_from_trash` no `activate_main`** (commit 1179bc7): Se a carta a ser jogada tem `activate_main` com `play_from_trash`, conta alvos no trash + campo e adiciona `n * 50` ao score. Five Elders com 4 alvos recuperáveis → +230 extra.

3. **`_evaluate_state` valoriza chars no trash recuperáveis** (commit 1179bc7): Para cada carta na mão que pode recuperar do trash (`play_from_trash`), o Turn Planner agora enxerga `n * 60` de valor nos chars elegíveis no trash. Faz a sequência atacar → trashar via líder → jogar Five Elders emergir naturalmente.

4. **The Empty Throne só joga CHARACTER** (commit 1056fe3): DB tinha `play_card` sem `card_type`, então escolhia o evento "Never Existed" (sub_type Five Elders) em vez de personagens. Fix: `"card_type": "CHARACTER"` no step + filtro correspondente no engine.

5. **`_trash_value` protege cartas de custo alto** (commit 1056fe3): Chars de custo ≥ 7 agora recebem `20 + custo * 8` (custo 10 → +100) mesmo sem DON disponível. Antes Five Elders era trashado quando o DON do turno era insuficiente para jogá-lo.

6. **`_should_activate_main` verifica condições do efeito** (sessão 18): `board_has_cost` e outros conditions do activate_main eram ignorados. Fix via `dummy_ee._check_conditions(conds, src)` no topo do método.

### parse_combat_log.py (commit f839e27)
- Script novo em `scriptis_da_ia/parse_combat_log.py`
- Lê o `.log` do simulador oficial e gera JSON estruturado: metadados, turnos, ações (play/activate/attack com resultado), snapshots (mão/campo/trash/vida)
- Detecta jogador por Draw Don, Draw Card, ou alternância (quando o log omite "Draw N Don")
- Uso: `python parse_combat_log.py partida.log --summary`
- Testado com partida Teach (OP16-080) vs Lucy (OP15-002): 22 turnos extraídos corretamente

### Commits desta sessão (2026-07-01):
- b1ea2f6: activate_main vira ação competitiva no Turn Planner
- 1179bc7: _score_play_action e _evaluate_state valorizam chars no trash recuperáveis
- 1056fe3: The Empty Throne só joga CHARACTER; _trash_value protege cartas de custo alto
- f839e27: parse_combat_log.py converte log do simulador oficial em JSON estruturado

**Pendências conhecidas:**
- Próximo passo com o parser: dado um snapshot de estado do log real, rodar o engine e comparar decisão da IA com o que o humano fez → identificar divergências concretas para tunar heurísticas
- [B] handlers sem log: `look_top_deck`, `negate_effect`, `activate_trash_event_main`, `lock_opp_don`
- Frontend (deferred até motor estar satisfatório)
- Supabase service_role exposta no `.env.local` — rotacionar antes de deploy público

---

## 2026-07-01 (18) - Claude

**Feito — Mihawk passive corrigido + activate_main aparece no replay log:**

1. **OP14-020 passive condicionado a `opp_leader_attribute: slash`**: O passive do Mihawk (`+1000 power this_turn`) não tinha condição — disparava contra qualquer oponente, incluindo Imu (líder OP13-079 com atributo `?`). Fix: adicionado `"conditions": {"opp_leader_attribute": "slash"}` no `card_effects_db.json`. Novo campo `opp_leader_attribute` em `_check_conditions` do engine.

2. **`_activate_main_effects` agora chama `_log_event`**: Ativações de efeitos [Activate:Main] não apareciam na tabela de eventos do ReplayViewer. Fix: após executar os steps via `ee.execute`, o resultado é logado com `_log_event(p, 'activate_main', card=src, description=...)`.

**Commits desta sessão (2026-07-01):**
- e96c245: Turn Planner + trash_char_or_hand fix
- 1a05572: 4 fixes [A] de jogabilidade
- b7a0388: Mihawk passive + activate_main log

**Pendências conhecidas:**
- [B] handlers sem log: `look_top_deck`, `negate_effect`, `activate_trash_event_main`, `lock_opp_don`, etc.
- Frontend (deferred até motor estar satisfatório)
- Supabase service_role exposta no `.env.local` — rotacionar antes de deploy público

---

## 2026-07-01 (17) - Claude

**Feito — 2 fixes sistêmicos de qualidade de decisão (Imu e padrão geral):**

1. **`_simulate_sequence` agora chama `_activate_main_effects` no loop**: O Turn Planner não chamava `_activate_main_effects` na simulação, então ao avaliar "jogar Saint Shalria", não via que isso habilitaria o líder Imu (trash→draw) e o stage (Empty Throne→play character). Fix: adicionado `_activate_main_effects(p2, opp2, ee2)` antes de cada iteração do loop em `_simulate_sequence`. Agora o planner captura combos multi-ação como jogar personagem → ativar líder → ativar stage → atacar.

2. **`_should_activate_main` trash_char_or_hand**: O filtro de tipo estava sendo aplicado à MÃO indevidamente. O texto correto do Imu é "trash 1 [Celestial Dragons] Character (campo) OR 1 card from your hand" — qualquer carta da mão, sem filtro de tipo. Fix: `hand_ok = p.hand` (sem filtro). Isso resolvia o líder Imu nunca ativando quando a mão não tinha Celestial Dragons.

**Contexto**: User mostrou replay onde Imu tinha 4 DON, 7 cartas, stage no campo, e só atacou+encerrou. A sequência correta (Saint Shalria→líder draw→Empty Throne→Warcury→atacar) agora deve ser capturada.

---

## 2026-07-01 (16) - Claude

**Feito — 4 correções de jogabilidade [A] no decision_engine.py:**

1. **Fix `_can_play_card` (linha ~5021):** Eventos com `[Counter]+main` (ex: OP13-040, OP13-098, OP14-096) estavam sendo bloqueados do main phase. A verificação `[counter] in text → return False` foi reordenada para só bloquear eventos pure-counter (sem trigger `main`). Esses eventos agora são jogados no main phase via trigger `main`.

2. **Fix `_has_don_reactive_use`:** Não detectava counter events com custo de play como motivo para reservar DON. Adicionado check `effective_hand_play_cost(me, c) > 0` para counter events na mão. Agora o AI reserva 1 DON quando tem counter event de custo 1 na mão.

3. **Novo método `_parse_counter_event_text_fallback`:** Parser leve do bloco `[Counter]` do texto bruto da carta. Usado quando `card_effects_db.json` tem `counter: 0` (bug do gerar_effects_db.py — não parseia bloco `[Counter]` de EVENT). Cobre o padrão "+X power during this battle" com suporte a condições `leader_is` e `trash_gte`. Testado com OP06-038, OP12-037, OP09-078: plans retornados corretamente. Verificado por trace: counter events agora USADOS (ex: OP13-098 used 4x em 1 partida).

4. **Fix `_score_play_action`:** Personagens com `when_attacking` ganham `habilita_ataque=True` (+60 bonus para sair antes dos ataques). Personagens com `activate_main` ganham +30 bonus base.

**Resultado auditoria (25 partidas, seed=42):**
- `activate_main NUNCA ativado: 0 cartas` (era multiple antes — Imu leader, Five Elders, etc. agora ativam)
- Counter events estão sendo usados (verificado por monkey-patch; o audit não os vê porque `try_counter_event_power` bypassa `EffectExecutor.execute`)
- [A] restante: Garp/Whitebeard (correto — condição de líder), Carrot when_attacking (amostras pequenas), OP13-040 counter (consumido no main phase, não como counter — correto)

**Pendências [A] que ficaram:**
- Carrot (OP08-023) `when_attacking` — personagem provavelmente morto antes de atacar; ou amostra pequena. Não é bug de engine, é scoring/heurística.
- Pure counter events (OP06-038, OP12-037) aparecem em [A] no audit — artefato: o audit não captura `try_counter_event_power`. Verificado por trace que funcionam.

**Próximo:** Resolver [B] (handlers sem log: `look_top_deck` 3329x, `negate_effect` 287x, `activate_trash_event_main` 164x, `lock_opp_don` 141x, `keyword_blocker`, `immunity`, `substitute_removal`).

---

## 2026-07-01 (15) - Claude

**Feito — revisão e commit do trabalho do Codex (sessão anterior).**
Nenhum código alterado, só commit + push do estado local.

---

## 2026-07-02 - Codex

**Feito — primeira versão do compliance checker:** criado
`scriptis_da_ia/audit_card_effects.py`. Ele roda partidas reais e instrumenta
`EffectExecutor.execute()` / `_execute_step()` para medir:
- triggers parseados chamados;
- triggers chamados que produziram log observável;
- actions executadas;
- actions executadas sem log;
- triggers de cartas presentes na amostra que nunca foram chamados.

**Validação:** `python -m py_compile scriptis_da_ia\audit_card_effects.py`;
`python audit_card_effects.py --n 3 --seed 42 --top 8 --min-calls 1`;
`python audit_card_effects.py --n 10 --seed 42 --top 12 --min-calls 2`.
As duas execuções terminaram sem exceções.

**Leitura importante:** isto é triagem por evidência de execução, não prova
oficial carta-a-carta. Suspeitos persistentes da amostra de 10 partidas:
`OP08-040 Atmos` (`on_play`) e `OP14-027 Shanks` (`when_rested`) foram chamados
muitas vezes sem log observável; também apareceram actions como `look_top_deck`,
`lock_opp_don`, `keyword_blocker`, `substitute_removal` e `immunity` sem log,
que podem ser no-op legítimo ou falta de mensagem/efeito observável.

**Investigação posterior:** `OP08-040 Atmos` era bug real causado por typo no
dado bruto (`Whitebeard Piratess`). A engine agora normaliza esse typo ao
checar `leader_type(_includes)`, e o smoke cobre o bounce com Leader
`Whitebeard Pirates`. `OP14-027 Shanks` tinha filtro perdido no parser/banco:
`rest_opp_character` agora captura `power_lte` para "base power or less", e o
banco atual recebeu `power_lte=7000`. No rerun do compliance, Atmos sumiu dos
suspeitos; Shanks passou de "chamado sem log" para "nunca chamado" na amostra,
indicando problema de uso/seleção na IA ou baixa oportunidade, não handler.

## 2026-07-02 (14) - Claude — ÚLTIMA DESTA SESSÃO

**Feito — Replay Viewer com popup de cartas + compliance checker infrastructure.**

**Backend (Python):**
- `OPTCGMatch.simulate_replay(name_a, name_b)` — roda 1 partida e retorna
  log estruturado de eventos por turno. Eventos: `turn_start`, `draw`,
  `play_card`, `effect` (efeitos on_play), `attack`, `life_damage`.
  Cada evento tem `{turn, player, player_name, phase, type, card, target, description}`.
  `card/target` incluem `{code, name, image, cost, power, type, color}`.
- `_CARD_IMAGE_CACHE` — dict code→URL de imagem carregado pelo `load_cards_db`
  para enriquecer eventos sem modificar Card/CardData.
- `_log_event(p, type, card, ...)` — helper em OPTCGMatch, no-op quando
  `replay_log is None` (modo normal, zero overhead).
- `replay_optcg.ReplayMatch._get_engine_match()` — adicionado `replay_log=None`
  e `_name_a/_name_b` para o `OPTCGMatch.__new__` não ter AttributeError.
- API `POST /replay` em `api.py` — aceita `{deck_a, deck_b, name_a, name_b}`,
  usa `simulation_worker.load_deck()`, retorna `simulate_replay()` result.

**Frontend (Next.js):**
- `src/components/ReplayViewer.tsx` — modal completo com:
  - Timeline de turnos (botões coloridos A=azul/B=vermelho)
  - Eventos do turno atual com ícones por tipo
  - Popup de imagem da carta ao hover (com card_image da API)
  - Navegação Anterior/Próximo + Auto-play (1.5s/turno)
  - Informações do evento: nome, descrição, alvo
- `src/app/simulate/page.tsx` — integrado:
  - `startReplay()`: chama `/replay`, carrega deck_b dinamicamente (pasted
    preview, own deck via Supabase, ou deck_a como fallback)
  - Botão "🎬 Ver Replay de 1 Partida" aparece após resultado da simulação
  - Modal `<ReplayViewer>` controlado por `showReplay` state

**Próximo:** compliance checker (`audit_card_effects.py`) para detectar
  automaticamente efeitos que não disparam.

---

## 2026-07-02 (13) - Claude

**Feito — otimização estrutural de deepcopy no Turn Planner: 2.8x speedup.**

**Técnica:** `_SimDeck` (list subclass com copy-on-pop lazy) + mesmo truque do
  `opp.deck` aplicado agora ao `p.deck` também.

`_simulate_sequence_once` agora:
1. Zera ambos os decks antes do `deepcopy(state)` (evita copiar ~80 Cards cada)
2. Restaura como listas rasas: `p2.deck = _SimDeck(p.deck)` e `opp2.deck = list(opp.deck)`
3. `_SimDeck.pop()` deepcopia a carta APENAS quando ela é efetivamente sacada
   durante a simulação — normalmente 0-2 por chamada, não 80.

**Correctness:** `_SimDeck(list)` é uma lista nova (não compartilha o objeto
  lista com `p.deck` — `list.__init__(other_list)` copia os elementos). Cards
  popped são deepcopiados no momento do pop, então mutações na simulação nunca
  afetam `p.deck`. Validado em 100 partidas (4 seeds × 25) — 0 exceções, 0
  anomalias de conservação de DON.

**Benchmark:** `_simulate_sequence_once`: 0.85ms → 0.30ms por chamada (2.8×),
  `main_phase` (36 calls): 31ms → 11ms. O gargalo era `deck (~80 cards) =
  0.7ms` de 1.2ms total; com lazy copy, só as cartas efetivamente sacadas são
  deepcopiadas.

---

## 2026-07-02 (12) - Claude

**Feito — OP15-074 Varie (foto recebida do usuário) + fix de duração.**

Dois bugs confirmados pela foto:
1. **CSV errado**: "DON!! 1" sem o sinal de menos → corrigido para "DON!! -1"
   em `cards_rows.csv`. Sem a correção, `parse_costs` não reconhecia o custo
   e o efeito ativava de graça.
2. **Duração errada**: `parse_cost_debuff` mapeava toda duração "until the end
   of your opponent's next End Phase" para `until_opp_turn_end`. Corrigido para
   distinguir "end phase" → `until_opp_end_phase` vs "turn" → `until_opp_turn_end`.
   Bonus: 3 cartas com o mesmo bug corrigidas (OP12-119, OP14-082, OP14-098).

Efeito correto agora: **[Main] DON!! −1** (custo don_minus:1), leader_is='enel',
draw 1 + buff_cost +2 own_character duration=until_opp_end_phase.
**[Counter]** buff_power +2000 filter_type='enel'.

TODO.md: item "OP15-074 Varie — DON sem sinal, aguarda foto" fechado.

**Pendências restantes (lista limpa):**
- Otimização estrutural de deepcopy no Turn Planner (dívida técnica de performance)
- Rotação de chaves Supabase (antes de deploy público)
- 3 gaps de parser intencionalmente sem efeito (ID mismatch, info-only, regra de deck)

---

## 2026-07-02 (11) - Claude

**Feito — gaps: 4 → 3 (intencionais), 2334 → 2335 com efeito. Auditoria de
gaps finalizada.**

Último gap implementável: **ST13-003 Luffy Leader** — "Your face-up Life cards
are placed at the bottom of your deck instead of being added to your hand,
according to the rules." Novo campo `face_up_life_to_deck: bool` em `GameState`.
Novo action `face_up_life_to_deck_rule` — setado via passive execution em
`apply_your_turn_buffs` a cada turno que o Leader ST13-003 está ativo. A
resolução de dano em `_execute_attack` (linha ~6502) checa este flag: se
`life_card.life_face_up and opp.face_up_life_to_deck` → card vai para
`opp.deck.insert(0, ...)` (fundo do deck) em vez de `opp.hand`.

**3 gaps intencionalmente sem efeito (de 51 originais):**
  - EB03_OP05-006_p1 — falso positivo de ID (parsa como OP05-006 base)
  - OP01-105 Bao Huang — "Choose 2 cards from your opponent's hand; your opponent
    reveals those cards" — info-only, sem mudança de estado de jogo
  - OP16-042 Prisoner of Impel Down — "You may have any number of this card" —
    regra de deckbuilding, sem efeito durante a partida

**Auditoria de gaps: CONCLUÍDA.** 2614 cartas no banco, 2335 com efeito (era
  2272 no início da sessão total, +63 esta rodada; a auditoria partiu de 51
  gaps reais e chegou a 3 intencionais).

---

## 2026-07-02 (10) - Claude

**Feito — gaps restantes: 14 → 4, 2324 → 2334 com efeito.**

Dispatch fixes + novas mecânicas implementadas nesta rodada:
- **OP15-031 / OP02-025**: m_pu estava dentro de parse_set_base_power (função
  que só é chamada quando "base power becomes" ou "set the power of" estão no
  texto) — movido para dispatch próprio em parse_block. OP02-025 regex
  `.{0,30}` muito curta (57 chars entre "character card" e "cost will be
  reduced") → ampliado para `.{0,80}`.
- **swap_base_power** (OP14-001 Law Leader / OP14-017 Chambres): engine seleciona
  2 chars do lado especificado, troca seus `base_power_override`.
- **mass deck_bottom** (OP05-058): `place_opp_character_bottom_deck count=99
  cost_lte=3` — a segunda parte (equalizar mãos) não implementada.
- **ko_battled_opp_char_and_self** (ST08-013 Mr.2): KO o melhor char do oponente
  + KO self (simplificação: escolhe melhor por board_value em vez do que "battled").
- **redirect_attack_target** (OP14-060 Doflamingo): parser only — no-op no engine
  (interrupcao de resolução de ataque é inviável com arquitetura atual).
- **activate_trash_event_main** (EB03-031): parser only — no-op no engine.
- **when_attacking_after_battle** (OP04-047): parsed como ação de `place_opp_character_
  bottom_deck` dentro do bloco `your_turn`; engine vai tentar executar no início
  do turno (timing errado, mas registrado para analysis_db).
- **EB03-031, OP10-022, OP02-025**: parsers mínimos para coverage análise.
- **OP12-040 Kuzan + OP02-025 Kin'emon**: já parseavam, só precisavam de dispatch
  fix / regex width.

**4 gaps restantes (de 51 originais):**
  - EB03_OP05-006_p1 — ID mismatch (parsa como OP05-006, falso positivo)
  - OP01-105 Bao Huang — info-only (revelar mão do oponente, sem estado)
  - OP16-042 Prisoner of Impel Down — regra de deckbuilding
  - ST13-003 passive — "face-up life → deck" em vez de mão (regra de dano
    modificada, requer mudança em todos os pontos de damage resolution)

**Validação:** `diff_parser.py` (PERDEU=0, 10 GANHOU); `gerar_dbs.py` (2334
  com efeito); `smoke_test.py` (100%); `smoke_test_broad.py` (40/40);
  `audit_replay.py --n 20 --seed 7` e `--n 15 --seed 99` (0 exceções, 0 anomalias).

---

## 2026-07-02 (9) - Claude

**Feito — gaps restantes: 19 → 11, 2319 → 2324 com efeito.**

Problemas de dispatch corrigidos (itens que estavam implementados mas não chegavam ao banco):
- **OP04-097 Otama** (`place_opp_char_to_opp_life`): regex `.{0,20}` insuficiente para
  "[animal] or [smile] type characters" (29 chars) → alargado para `.{0,45}`. Dispatch
  corrigido para `'add up to' in t` em vez de regex de path errado.
- **OP09-033 Nico Robin** (`grant_ko_immunity_type`): dispatch checava `"cannot be k.o.'d by"`
  mas texto usa `"can be k.o.'d by"` (negação via "none of", não via "cannot"). Corrigido.
- **OP07-002 Ain** (`set_base_power target=opp_character`): dispatch `parse_set_base_power`
  só disparava com "base power becomes" — adicionado `or 'set the power of' in t`.

Novos parsers/ações:
- **OP06-086 Gecko Moria**: dispatch `parse_play_from_trash` ampliado para aceitar
  "play N card" sem "up to" — dois steps `play_from_trash` (cost≤4 normal + cost≤2
  rested) já eram produzidos corretamente pela função, só o dispatch faltava.
- **OP15-031 Purinpurin**: nova ação `ko_if_cost_eq_don` — engine seleciona rested
  Character do oponente onde `c.cost == c.don_attached` e KO. Parser detecta
  "if the chosen Character has a cost equal to the number of DON!! cards given to it, K.O. it".
- **ST13-003 Luffy Leader** (partial): parser de `gain_life` agora aceita "from your
  hand or trash to the top of your life" (padrão com "trash" na source — antes bloqueado
  pelo guard `'trash' not in m.group(0)`). Resolvido com regex específico antes do
  guard geral. Activate:Main agora parseia (life_lte=0 condition + gain_life hand source).
  A regra passiva "face-up life → deck" continua sem implementação de engine (muito
  complexo, 1 carta).
- **OP12-040 Kuzan Leader**: simplificação — `draw dynamic=True` para analysis (trigger
  reativo real "draw = número de cartas descartadas por Navy" não modelado no engine).
- **OP02-025 Kin'emon Leader**: simplificação — `buff_cost target='own_play_hand'
  duration='next_play_only'` para analysis (one-shot cost reduction para próxima
  jogada não modelado no engine, mas registrado no DB).

**Bug crítico evitado (duas vezes nesta sessão):** editar dentro de `parse_set_base_power`
sem respeitar que o `step = {...}` pertence ao for-loop causa PERDEU em dezenas de cartas
(indentação quebra a pertença ao loop). Cuidado extremo ao editar esta função.

**Gaps restantes: 11** (de 51 iniciais):
  - 3 não-jogáveis: EB03_OP05-006_p1 (ID mismatch), OP01-105 (info only), OP16-042 (regra de deck)
  - 8 mecânicas genuinamente novas: swap de poder (OP14-001/017), redirect ataque
    (OP14-060), EB03-031 (activate Event from trash), OP04-047 (end-of-battle trigger),
    OP05-058 (mass deck_bottom + equalizar mãos), OP10-022 (bounce cost + reveal life + play),
    ST08-013 (mutual KO after battle).

**Validação:** `diff_parser.py` (PERDEU=0); `gerar_dbs.py` (2324 com efeito);
  `smoke_test.py` (5 testes novos, 100%); `smoke_test_broad.py` (40/40);
  `audit_replay.py --n 20 --seed 7` (0 exceções, 0 anomalias).

---

## 2026-07-02 (8) - Claude

**Feito — 4 gaps de mecânica nova (pedidos do usuário), 2315 → 2319 com efeito.**

1. **`grant_ko_immunity_type` (OP09-033 Nico Robin):** "If you have 2 or more
   rested Characters, none of your 'ODYSSEY' or 'Straw Hat Crew' type Characters
   can be K.O.'d by effects until the end of your opponent's next turn." Novo
   campo `immunity_ko_until: str` em Card (mesmo padrão de `cannot_attack_until`).
   Nova ação `grant_ko_immunity_type` com `filter_type` e `duration`. Checado em
   `is_immune()` antes do return False. Reset em `refresh_phase`. Nova condição
   `chars_rested_gte` em `parse_conditions`. Parser: `parse_grant_ko_immunity`.
   Bônus: 17 outras cartas OP09-xxx com "2 or more rested characters" também
   ganharam a condição `chars_rested_gte=2` em seus effects existentes.

2. **`place_opp_char_to_opp_life` (OP04-097 Otama, OP05-111 Hotori, EB02-057
   Mad Treasure):** "Add up to N of your opponent's [X] Characters with a cost
   of Y or less to the top/bottom of your opponent's Life cards face-up." Remove
   character do campo do oponente via `remove_character_from_field(..., 'hand')`
   (sem trigger on_ko), seta `life_face_up=True` e insere em `opp.life`. Parser:
   `parse_opp_char_to_opp_life`. Engine handler em `decision_engine.py`.

3. **`set_cost_to_0` / `filter_no_effect` (OP03-091 Helmeppo):** "Set the cost
   of up to 1 of your opponent's Characters with no base effect to 0 during this
   turn." Novo padrão em `parse_cost_debuff`: regex `set the cost of up to N...
   to X`. Novo campo `to_value` no step (engine calcula `cost_buff += -(
   effective_cost - to_value)` no momento de aplicação, sem precisar do custo
   no parse time). Novo flag `filter_no_effect` em candidatos (filtra Characters
   com `get_card_effects().get('effects')` vazio).

4. **`self_cant_take_life` (ST15-001 Atmos + OP02-004, OP02-023, OP06-020):**
   "You cannot add Life cards to your hand using your own effects during this turn."
   Novo campo `cant_take_life_this_turn: bool` em `GameState`, resetado em
   `refresh_phase`. Engine: `life_to_hand` retorna '' imediatamente se flag ativa.
   4 cartas no banco com esse texto (achado 3 bônus no processo).

**Validação completa:** diff (PERDEU=0 em todos), gerar_dbs (2319 com efeito),
  smoke_test (100%, 2 testes novos por item), smoke_test_broad (40/40),
  audit_replay seeds 7 e 99 (0 exceções, 0 anomalias).

---

## 2026-07-02 (7) - Claude

**Feito — Auditoria de gaps (rodada 3): 23 gaps finais, 2315 com efeito.**

Continuação direta da rodada anterior. Mecânicas novas implementadas nesta rodada:
- `set_base_power` target='opp_character' + duração 'this_turn' — OP07-002 Ain.
  Cuidado: bug de indentação detectado e corrigido durante a implementação
  (o bloco m_opp foi inadvertidamente indentado dentro do if, quebrando o
  for loop original — PERDEU=2 transitório, corrigido, validado PERDEU=0).
- `opp_don_on_field_lte` condição (simétrica à `opp_don_on_field_gte`) —
  PRB02-005 Luffy (oponente tem 7 ou menos DON).
- `rest_opp_don` dispatch broadened: aceita "rests" (conjugado) além de
  "rest" — PRB02-005 "your opponent rests 1 of their active DON!! cards."
- `opp_shuffle_hand_into_deck` com `draw_back=N` — OP06-047 Charlotte Pudding:
  força oponente a reciclar mão no deck e recomprar N. Engine + parser.
- `opp_life_to_hand` — P-009 Law: oponente move carta da própria vida para mão.
- `play_from_deck` por NOME (`filter_name`) — ST03-007, OP08-071, OP08-073.
- `buff_cost target='own_play_hand'` — OP05-097 Mary Geoise (analítico).
- `opp_place_trash_bottom_deck` player-iniciado — OP15-091 Margarita.
- `opp_shuffle_hand_into_deck` + `opp_life_to_hand` engine handlers em
  `decision_engine.py`.
- `set_active` + `set_don_active` combo (Jinbe Leader OP11-021).
- Vários outros fixes de dispatch (rests? \d+, cost sem sinal, can attack on
  the turn, look_at up to/the top N, reveal+conditional-play, bounce own type).

**23 gaps restantes** — esses exigem mecânica genuinamente nova de engine
ou são casos aceitáveis como informação-only/DB anomaly:
  - **DB anomaly**: EB03_OP05-006_p1 (ID mismatch, parses como OP05-006)
  - **Info-only**: OP01-105 Bao Huang (revelar mão do oponente), OP16-042
    Prisoner of Impel Down (regra de deckbuilding)
  - **Novo mecanismo complexo**: OP04-097/OP05-111/EB02-057 (add opp Character
    à vida face-up do oponente), OP05-058 (mass deck_bottom + equalizar mãos),
    OP06-086 Gecko Moria (jogar 2 do trash com custos diferentes), OP09-033
    Nico Robin (mass immunity temporário por tipo), OP10-022 Law Leader
    (bounce cost + peek life + conditional play), OP12-040 Kuzan Leader
    (trigger reativo ao descarte do oponente), OP14-001/017 (swap de poder),
    OP14-060 Doflamingo (redirect ataque), OP15-031 Purinpurin (KO se custo=DON
    anexado), OP02-025 Kin'emon Leader (delay cost reduction), OP03-091
    Helmeppo (set cost to 0 conditional), OP04-047 Ice Oni (end-of-battle
    trigger), EB03-031 Vinsmoke Reiju (activate Event's Main from trash),
    ST08-013 Mr.2 (mutual KO after battle), ST13-003 Luffy Leader (life rule
    change), ST15-001 Atmos (restriction add life to hand), PRB02-005 Luffy
    (delayed rest opp DON — simplification needed), EB02-057 Mad Treasure.

**Validação:** `diff_parser.py` (PERDEU=0 após correção do bug de indentação);
  `gerar_dbs.py` (2315 com efeito); `smoke_test.py` (100%);
  `smoke_test_broad.py` (40/40); `audit_replay.py --n 20 --seed 7` (0
  exceções, 0 anomalias).

---

## 2026-07-02 (6) - Claude

**Feito — Auditoria de gaps (rodada 2): 51 → 24 gaps, 2286 → 2314 com efeito.**

Esta rodada focou nos gaps que ficaram da auditoria anterior, abordando grupos
de parser com regex simples e mecânicas novas implementáveis. Mudanças
por categoria:

**Regex/dispatch corrigidos (sem mechanic nova):**
- `look_at` aceita "look at up to N" e "look at the top N" (OP02-005, OP05-117)
- `parse_reveal_top_play`: aceita "add to hand" (ST11-001) e condicional "if that
  card is X, play rested" (OP01-060, OP07-048); também "character" sem "card"
- `lock_opp_character_attack` aceita "leader or character cards" + "cards" após
  "character" (OP04-100) e "during this turn" além de "until" + `power_lte`
  (EB04-028)
- `parse_rest_opp`: dispatch broadened para "rest N" sem "up to"; aceita "cards"
  além de "characters" (P-008, OP13-033 → já commitados antes)
- `parse_cost_debuff`: dispatch broadened para custo SEM sinal + sinal fullwidth
  － (P-076, OP08-082, OP08-083 + 6 bônus em cartas existentes)
- `parse_can_attack_active` + dispatch: aceita "can attack characters on the turn
  in which it/they is/are played" = Rush semântico (OP04-096, OP11-027 + bônus)
- Dispatch `parse_play_from_trash`: cobre "play this character card from your
  trash" + "add this character card to your hand" (P-071, OP09-052, OP15-080
  Oars + bônus OP02-018, OP14-120, ST30-008)

**Mecânicas novas implementadas:**
- `opp_shuffle_hand_into_deck(draw_back=N)` — OP06-047 Charlotte Pudding:
  força oponente a reciclar mão no deck e recomprar N. Engine em
  `decision_engine.py`, parser em `gerar_effects_db.py`.
- `opp_life_to_hand` — P-009 Law: oponente move carta de sua própria vida para
  a mão (enfraquece vida dele). Parser + engine handler adicionados.
- `play_from_deck` por NOME via filter_name (em vez de filter_type): ST03-007
  Sentomaru "[Pacifista]", OP08-071 "[Baron Tamago]", OP08-073 "[Count Niwatori]".
- `opp_place_trash_bottom_deck` iniciado pelo jogador ativo: OP15-091 Margarita.
- `buff_cost` target='own_play_hand': OP05-097 Mary Geoise (registro analítico;
  engine já trata via hardcode).
- `opp_life_to_hand` + set_active OR set_don_active combos: OP11-021 Jinbe Leader.
- `gain_rush` via `parse_can_attack_active` para "can attack Characters on the
  turn in which it is played" (OP04-096 Corrida Coliseum passivo + OP11-027).
- `give_don` target-first: `give [alvo] up to N rested DON!!` — ST01-001 + bônus.

**Bugs colaterais corrigidos no processo:**
- `parse_look_at` guard life-cards: impede falso positivo para "look at ... Life
  cards" (EB02-053, OP03-099 perdiam look_top_deck que estava errado; corrigido
  para não mais disparar nesses casos).
- OP11-062, OP11-070: perderam look_top_deck incorreto sobre o deck do OPONENTE;
  esses efeitos eram no-op silencioso incorreto antes.

**Gaps restantes (24):** maioria exige mecânica genuinamente nova —  swap de
poder (OP14-001/017), redirect ataque (OP14-060), trigger reativo ao descarte do
oponente (OP12-040), efeito com "at the end of a battle" (OP04-047, ST08-013),
adicionar character do oponente à vida dele (OP04-097, OP05-111, EB02-057),
regra de baralho (OP16-042, EB03_OP05-006_p1 = ID mismatch, OP01-105 = info).

**Validação:** `diff_parser.py` (PERDEU=0 em todos os rounds);
  `gerar_dbs.py` (2314 com efeito); `smoke_test.py` (100%);
  `smoke_test_broad.py` (40/40); `audit_replay.py --n 20 --seed 7` e
  `--n 15 --seed 99` (0 exceções, 0 anomalias).

---

## 2026-07-02 (5) - Claude

**Feito — dead wood + reauditoria de cartas com effects vazio.**

**Dead wood (linha 477 do TODO):** item "substituição externa OP07-029/OP16-014
  fora de escopo" estava desatualizado — ambas implementadas na sessão de hoje.
  Marcado como `[x]` no TODO.

**Reauditoria de effects vazios:** contagem real era 2286 com efeito (não
  "2148" do TODO antigo). Script de varredura identificou 54 gaps reais
  (excluindo NULL, variantes de ID canônico, errata) em 3 grupos. O Grupo C
  (parser menores) foi corrigido na hora — 9+ cartas novas + 20+ ajustes
  em cartas existentes:
  - `gain_can_attack_active` aceita variante "your opponent's active
    Characters" (OP01-021, OP02-014, OP06-110, +1).
  - `give_don` aceita "Give [target] up to N rested DON!!" com alvo antes
    de "up to" — ST01-001 + 6 cartas com give_don em on_play/activate_main
    que vinham sem esse step.
  - `opp_place_trash_bottom_deck` player-iniciado ("Place up to N card from
    your opponent's trash at the bottom of the owner's deck") — OP15-091.
  - `rest_opp_character` sem "up to" e aceitando "cards" em vez de
    "characters" — P-008 Yamato, OP13-033 Franky + custo cost_lte em 8
    cartas que tinham rest_opp_character sem o filtro de custo.
  - `play_from_trash filter_self=True` mapeado de "add this Character card
    to your hand" (K.O. recovery) — P-071 Marco.
  - `set_active + set_don_active` combinados para "Set this Character or
    up to N DON!! cards as active" — OP13-035 Bepo.
  Grupo B (~30+ cartas) deixado para futuros itens: swap de poder, redirect
  ataque, triggers de "quando oponente descarta", etc.

**Validação:** `diff_parser.py` (`PERDEU=0`, 6 GANHOU + 20 MUDOU);
  `gerar_dbs.py` (2286 com efeito); `smoke_test.py` (100%);
  `smoke_test_broad.py` (40/40); `audit_replay.py --n 20 --seed 7` e
  `--n 15 --seed 99` (0 exceções, 0 anomalias).

---

## 2026-07-02 (4) - Claude

**Feito — timing `when_rested` + fix typo OP14-119 (Mihawk).**

Dois problemas paralelos bloqueavam OP14-119 completamente:
1. **Typo no CSV**: "with a cost **or** 9 or less" em vez de "**of** 9".
   Fix: regex de `lock_opp_cannot_be_rested` aceitando `(?:of|or)` antes do
   número (1 linha em `gerar_effects_db.py`).
2. **Timing "when becomes rested" sem parser**: novo `when_rested` em
   `trigger_patterns`, posicionado **antes** de `your_turn` para ter prioridade,
   com lookahead negativo em `your_turn` para não duplicar o bloco. Engine:
   `when_rested` disparado em `_execute_attack` após `attacker.rested = True`.

Bônus: 5 outras cartas do set OP14 (OP14-021/027/028/032/035) que também usam
"When this Character becomes rested" estavam sendo classificadas como
`your_turn` (disparavam no início de cada turno, não quando a carta de fato
ficava rested). Agora migradas para `when_rested` corretamente.

**Simplificação documentada:** `when_rested` dispara APENAS via `_execute_attack`
(carta ataca e fica rested). Resting via custo de Activate:Main (`rest_self`)
não dispara — 0 cartas reais afetadas hoje; reabrir se aparecer carta com
Activate:Main + "when becomes rested" simultaneamente.

**Validação:** `diff_parser.py` (`PERDEU=0`, 6 MUDOU corretos);
`gerar_dbs.py` + `snapshot_parser.py`; `smoke_test.py` (2 testes novos);
`smoke_test_broad.py` (40/40); `audit_replay.py --n 20 --seed 7` e
`--n 15 --seed 99` (0 exceções, 0 anomalias).

---

## 2026-07-02 (3) - Claude

**Feito — os 4 itens do usuário em sequência: substituição externa (2
cartas), imunidade/exclusão (2 cartas), 5 funções órfãs, deepcopy.**

**Substitução externa (OP07-029 + OP16-014):**
- *OP07-029 (Basil Hawkins)*: novo cost type `rest_opp_character` em
  `_parse_substitute_cost` + handler em `_pay_substitute_cost` (resta o
  melhor Character do oponente, verifica imunidade a rest). Bônus: o
  `rfind('if ')` trick corrigiu um bug silencioso no split de prefixo de
  `parse_block` — o regex original `if .*?` consumia a partir do PRIMEIRO
  "if" do texto (e.g. a condição de tipo do Leader), deixando o prefixo
  vazio; a nova heurística localiza o "if" mais próximo de "would be
  removed from the field". Bônus 2: ST15-005 também ganhou `gain_rush`
  que estava sendo silenciado pelo mesmo bug.
- *OP16-014 (Marco)*: novo flag `no_filter` em
  `_apply_substitute_target_filters` (marcado quando o sujeito do "if
  X would be removed" é genuinamente irrestrito — "one of your
  characters" sem nenhum filtro). `_target_matches_external_substitute`
  agora retorna True quando `no_filter=True`, em vez de tratar
  "nenhuma chave de filtro" como "proteção desligada" (padrão de
  segurança pra falha de extração, não pra ausência real de filtro).
  Custo "K.O. this character instead" mapeado para `trash_self`
  (simplificação documentada: on_ko de self-ressurreição não dispara
  no contexto de substituição).

**Imunidade/exclusão (OP16-032):** regex de `lock_opp_cannot_be_rested`
  /`lock_opp_character_attack` extendido com grupo opcional `(?: other
  than \[([^\]]+)\])?` — agora extrai `exclude` diretamente no parser,
  sem handler de engine adicional (engine já lia `step.get('exclude')`
  desde a implementação original). OP16-032 Boa Hancock agora tem
  `on_play: lock_opp_cannot_be_rested exclude='monkey.d.luffy'` correto.
  OP14-119 (Mihawk, trigger "when this Character becomes rested") ficou
  de fora: exigiria modelar um novo tipo de timing de gatilho não
  suportado, impacto baixo, 1 carta.

**5 funções órfãs (→ 5 deletadas, 1 restaurada):** AST scan detectou 6
  candidatas. Deletadas via script de remoção de linhas: `_count_available
  _attacks`, `choose_card_to_play`, `plan_don_distribution`,
  `plan_attacks`, `_distribute_don` (5 genuinamente mortas, -345 linhas).
  `_mulligan_decision` foi deletada por engano e restaurada depois: é
  chamada por `replay_optcg.py` via `self._get_engine_match()._mulligan_
  decision(...)` — não aparecia no scan interno porque só é chamada
  externamente. Lesson learned: AST scan de "funções não chamadas dentro
  do arquivo" não detecta calls de arquivos externos.

**Deepcopy (otimização menor):** dois pontos em `GameState.__deepcopy__` e
  `_simulate_sequence_once`: (a) `full_deck_census` agora é referência
  compartilhada (invariante de partida, nunca mutado); (b) `opp.deck` em
  `_simulate_sequence_once` usa `list()` em vez de deepcopy por card —
  salva ~0.5-0.7ms por chamada de simulação (opponent não age durante a
  simulação do turno ativo). A dívida maior (clone incremental) permanece.

**Validação:** `diff_parser.py` (PERDEU=0, 1 GANHOU + 6 MUDOU);
  `gerar_dbs.py` + `snapshot_parser.py`; `smoke_test.py` (2 testes
  novos, 100%); `smoke_test_broad.py` (40/40);
  `audit_replay.py --n 20 --seed 7` e `--n 15 --seed 99` (0 exceções, 0
  anomalias).

---

## 2026-07-02 (2) - Claude

**Feito - corrige a "simplificação consciente" do item anterior
(opp_hand_gte), a pedido do usuário.** O item (1) abaixo tinha deixado
registrado que a condição "if opponent has N+ cards in hand" (prefixo de
5 das 13 cartas de place-at-bottom-of-deck) não estava sendo checada — a
ação disparava sempre, só coincidindo com a regra real quando a mão do
oponente estava em 0. Usuário pediu exemplo concreto, viu que com mão
intermediária (1 a N-1 cartas) a ação tira uma carta que a regra real não
tiraria, e pediu correção.

Nova condição `opp_hand_gte` em `parse_conditions` (`gerar_effects_db.py`,
mesmo molde de `hand_gte` já existente mas sobre `opp.hand`), plugada em
`_check_conditions` e no pre-filtro do Turn Planner
(`decision_engine.py`). Escopo real saiu maior do que os 5 cards
esperados — o mesmo gap textual ("if your opponent has N or more cards in
their hand") afetava TODA a família `opp_trash_from_hand`/`attack_life`
com esse prefixo, não só `opp_place_hand_bottom_deck`: 13 cartas no total
(EB02-045, EB03-026, EB04-022, OP05-082, OP06-093, OP07-047, OP08-046,
OP09-087, OP10-087, OP10-118, OP12-087, OP16-047, ST13-009).

**Validação:** `diff_parser.py` (`PERDEU=0`, 13/13 MUDOU — só ganharam o
gate, nenhum efeito novo nem perdido); `gerar_dbs.py` + `snapshot_parser.py`;
`smoke_test.py` (4 testes novos: 2 unidade + 2 end-to-end via carta real
OP08-046 abaixo/no limiar); `smoke_test_broad.py` (40/40);
`audit_replay.py --n 20 --seed 7` e `--n 15 --seed 99`: 0 exceções, 0
anomalias.

---

## 2026-07-02 (1) - Claude

**Feito - os 2 itens "Parser — cobertura" pedidos pelo usuário: `opponent
has N+ DON` (8 cartas) e `place-at-bottom-of-deck` (13 cartas).** Ver
detalhe completo no TODO.md (seção "Parser — cobertura").

Resumo rápido:
1. **opp_don_on_field_gte**: nova condição em `parse_conditions`
   (`gerar_effects_db.py`), simétrica a `don_on_field_gte` já existente
   mas sobre o campo do OPONENTE. Infra de `conditions` já genérica — só
   regex + 2 linhas de `_check_conditions`/pre-filtro do Turn Planner.
   Achado real: OP02-089/090/091 disparavam "opponent returns 1 DON!!"
   SEM gate nenhum (sempre, mesmo com oponente em 0 DON) — bug real
   corrigido, não só cobertura nova.
2. **place-at-bottom-of-deck**: a busca textual ampla por "bottom of
   deck" trouxe ~80 cartas, mas a maioria já estava coberta por
   mecanismos existentes (`deck_top_rest`/`deck_reorder_rest`/custos de
   trash-pro-fundo). O gap real era uma família nova e coerente:
   disrupção FORÇADA no oponente com destino o FUNDO DO PRÓPRIO DECK
   dele (nunca trash) — 2 actions novas (`opp_place_hand_bottom_deck`,
   `opp_place_trash_bottom_deck` com `filter_type='event'`) em
   `decision_engine.py`, parser estendido em
   `parse_opp_self_move_character`. Bônus no caminho: OP06-092 (Brook)
   tinha um `Choose one:` com bullet corrompido (`�`) no `card_text`
   bruto que o split de `parse_block` já reconhecia — só faltava a 2ª
   opção ter parser pra virar uma `choice` de verdade.

**Validação dos dois itens:** `python -m py_compile`; `diff_parser.py`
(`PERDEU=0` nos dois); `gerar_dbs.py` + `snapshot_parser.py`;
`smoke_test.py` (4 casos novos, 100%); `smoke_test_broad.py` (40/40);
`audit_replay.py --n 20 --seed 7` e `--n 15 --seed 99` (0 exceções, 0
anomalias nas duas).

**Simplificação consciente, não corrigida:** a condição "if opponent has
N+ cards in hand" que prefixa várias das 13 cartas de
place-at-bottom-of-deck não ficou modelada como gate — mesmo padrão já
aceito pra família `opp_trash_from_hand` (a ação natural já não faz nada
com mão vazia/pequena). Registrar se reabrir o tema.

---

## 2026-07-01 (8) - Claude

**Feito - imunidade a rest forçado (imm_type='rest'), 3 cartas:** um
segundo agente de investigação que eu tinha disparado em paralelo (e cujo
resultado cheguei a achar que tinha falhado) voltou depois de eu já ter
fechado o item de auditoria de imunidade. Relatou um gap real: "cannot be
rested by your opponent's effects" — mas reportou 11 cartas afetadas.
Investigando, descobri que 8 dessas 11 já estavam corretamente
implementadas como `lock_opp_cannot_be_rested` — uma mecânica **oposta**
(trava o character do OPONENTE, beneficia quem ativa o efeito) que só
compartilha a palavra "rested" no texto com a autoproteção real. O agente
confundiu as duas por similaridade superficial. O gap genuíno era só 3
cartas: **OP11-046, OP12-021, OP15-024**.

Implementado: novo `imm_type='rest'` em `parse_immunity`
(`gerar_effects_db.py`), incluindo a forma composta "cannot be K.O.'d OR
rested by your opponent's effects" (OP11-046). `is_immune()` já era
genérico o suficiente pra qualquer `imm_type` sem precisar de mudança — só
documentei. Plugado em `rest_opp_character`
([decision_engine.py](scriptis_da_ia/optcg_engine/decision_engine.py)), o
único ponto real de "rest forçado por efeito do oponente" no banco hoje.

**Validação:** `python -m py_compile`; `python diff_parser.py` (`PERDEU=0`,
exatamente as 3 cartas esperadas); `python gerar_dbs.py` + `python
snapshot_parser.py`; `python smoke_test.py` (119/119, 4 casos novos);
`python smoke_test_broad.py` (40/40); `python audit_replay.py --n 20
--seed 7` e `--n 15 --seed 99` (0 exceções, 0 anomalias nas duas).

**Gaps menores não corrigidos** (achados de raspão, baixo impacto, 2
cartas): OP14-119 (`lock_opp_cannot_be_rested` com gatilho "when this
Character becomes rested" — trigger condicional não reconhecido pelo
parser, perde o efeito inteiro) e OP16-032 (mesma action, mas com exclusão
"other than [Nome]" não extraída — fica sem nenhum efeito parseado).
Registrado no TODO.md.

---

## RESUMO DA SESSÃO DE 2026-07-01 (encerrada aqui — próxima sessão deve
começar lendo este HANDOFF.md inteiro + `git log --oneline -20` antes de
qualquer coisa):

Sessão longa cobrindo, em sequência: (1) auditoria + correção da fila
"FILA ANTERIOR ainda aberta" do TODO.md (5 de 7 itens já estavam
implementados, 2 reais feitos — `lock_opp_attack_unless_pays` e
`deck_reorder_rest`/`deck_top_rest`); (2) família completa de substituição
externa (11 de 13 cartas + 2 bugs estruturais de parser corrigidos no
caminho); (3) auditoria de imunidade restante (confirmado sem gap real em
`EffectImmune`/`CombatImmune`/`ImmuneToStrikes`); (4) imunidade a rest
forçado (3 cartas). Todos os commits já enviados pro `origin/main`.

**Itens reais ainda abertos no TODO.md** pra próxima sessão: 5 funções
órfãs (deletar ou integrar), otimização de `deepcopy` no Turn Planner
(performance), revalidar contagem de cartas com `card_text` mas `effects`
vazio, `opponent has N+ DON` sem parser (~8 cartas), `place-at-bottom-of-deck`
mecânica nova (~14 cartas), OP15-074 Varie (aguarda foto — não dá pra
resolver sem a imagem), `lock_opp_cannot_be_rested` com gatilho "becomes
rested" + exclusão "other than [Nome]" (2 cartas, achado nesta sessão), e
rotação de chaves Supabase (segurança, antes de deploy público).

---

## 2026-07-01 (7) - Claude

**Feito - fecha item "auditoria de imunidade restante" (sem código, só
investigação + documentação):** próximo item da fila do TODO.md. Antes de
implementar, investiguei se `EffectImmune`/`CombatImmune`/`ImmuneToStrikes`
eram mecânicas reais com cartas afetadas — mesmo padrão de checar antes de
agir que rendeu bons resultados hoje.

**Achado:** são nomes de MECANISMOS INTERNOS do código oficial decompilado
(`_referencias/simulador-oficial/dnspy-export/Assembly-CSharp/ActV3Effect.cs`,
`GameplayLogicScript.cs` — flags como `bCombatImmune`, `bEffectImmune`,
`ImmuneToStrikes: List<StrikeType>`), não padrões de texto adicionais que
aparecem em cartas. Busquei direto em `cards_rows.csv` por variantes
textuais mais amplas ("cannot be affected", "immune to", "cannot be
targeted/selected/chosen", "unaffected", "ignores effects") e não achei
NENHUMA carta real usando esses padrões além do que `cannot be K.O.'d`/
`cannot be removed from the field` já cobre — e isso já está implementado,
incluindo a parte de atributo do atacante (Strike/Slash/Special/Wisdom/
Ranged/Leaders — que é literalmente "ImmuneToStrikes" na prática) feita
ontem (30/06). Confirmei com 2 exemplos reais (OP01-024, EB03-018) já
parseados corretamente.

**Resultado:** item fechado no TODO.md — não há mais gap de cobertura
conhecido na família de imunidade.

**Estado da sessão:** essa foi uma sessão longa cobrindo toda a "fila
anterior" do TODO.md pedida pelo usuário (itens 4-10 de uma lista
numerada, depois substituição externa completa, depois esta auditoria de
imunidade). Itens reais que ainda restam abertos no TODO.md: 5 funções
órfãs (deletar ou integrar), otimização de `deepcopy` no Turn Planner,
revalidar contagem de cartas com `card_text` mas `effects` vazio,
`opponent has N+ DON` sem parser (~8 cartas), `place-at-bottom-of-deck`
mecânica nova (~14 cartas), OP15-074 Varie (aguarda foto), e rotação de
chaves Supabase (segurança, antes de deploy público).

---

## 2026-07-01 (6) - Claude

**Feito - substituição externa: fecha 11 das 13 cartas restantes + 2 bugs
estruturais achados no caminho:** continuação direta da fatia anterior.
Implementei 7 cost-types novos em `_pay_substitute_cost`
([decision_engine.py](scriptis_da_ia/optcg_engine/decision_engine.py)):
`rest_leader`, `rest_own_filtered`, `rest_own_character`, `rest_own_card`,
`life_to_hand`, `life_to_trash`, `trash_to_deck_bottom` — com os padrões de
parser correspondentes em `_parse_substitute_cost`. Fechou OP04-082,
OP10-034, OP10-037, OP11-110, OP12-061, OP14-029, OP14-034, OP14-092,
OP15-035, ST09-010, ST20-002 (11 das 13).

**Bônus genuínos** pegos pelos mesmos padrões de regex, fora da lista
original (confirmados corretos por leitura do texto bruto): EB04-043,
OP15-098, OP15-105, e **OP11-001** — a primeira carta de substituição cuja
FONTE é um Leader (Koby), não um Character; funcionou sem nenhuma mudança
de engine porque `try_any_substitute()` já incluía `self.me.leader` na
lista de fontes externas desde a fatia anterior.

**2 bugs estruturais achados e corrigidos no processo** (não eram apenas
"faltava regex"):

1. `parse_substitute_ko`/`parse_substitute_removal` reivindicavam o BLOCO
   INTEIRO de texto ao achar a cláusula de substituição, descartando
   silenciosamente qualquer efeito incondicional que viesse ANTES dela no
   mesmo bloco. Pegou OP14-034 no meio do trabalho: a carta tem um
   `buff_power` sob a tag `[Your Turn]` seguido de uma sentença de
   substituição separada (sem tag própria) — como "[Once Per Turn]" não é
   uma tag formal reconhecida que para a captura do bloco `[Your Turn]`, o
   texto inteiro virava um blob só, e quando a substituição passou a ser
   reconhecida (graças à fatia anterior), ela "engolia" o buff junto.
   Corrigido extraindo o prefixo antes da cláusula e reparseando via
   `parse_block` recursivo. Sem nenhuma intervenção extra minha, o MESMO
   fix corrigiu ST25-003 (achado bônus, perdia `draw`+`play_card` pelo
   mesmo motivo).
2. `try_substitute()` e `_substitute_source_blocks()` só checavam a chave
   `'passive'` do banco — mas cartas com a tag formal `[Opponent's
   Turn]`/`[Your Turn]` ANTES da cláusula de substituição (OP14-029,
   OP14-092, OP14-034) fazem esse timing virar a chave de TOPO no parser,
   não `passive`. É o mesmo padrão que `is_immune()` já tratava
   corretamente (ela itera múltiplos timings); as duas funções de
   substituição não tinham recebido o mesmo tratamento. Ambas agora iteram
   `('passive', 'opp_turn', 'your_turn')`.

**Validação:** `python -m py_compile`; `python diff_parser.py` (`PERDEU=0`
em todas as rodadas, incluindo depois do fix do prefixo); `python
gerar_dbs.py` + `python snapshot_parser.py`; `python smoke_test.py`
(111/111, 11 casos novos); `python smoke_test_broad.py` (40/40); `python
audit_replay.py` com 3 seeds diferentes (`--n 20 --seed 7`, `--n 15 --seed
99`, `--n 25 --seed 321` — terceira rodada extra por causa do escopo amplo
da mudança no dispatch do parser): 0 exceções, 0 anomalias nas três.

**Ainda fora de escopo (2 cartas):** OP07-029 (mecânica invertida — rest 1
Character do OPONENTE como custo, precisa de design próprio) e OP16-014
(K.O. da própria fonte como custo, mas o texto real não tem NENHUM filtro
de alvo — "if one of your Characters would be removed... instead" — a
checagem de segurança atual trata "sem filtro" como "não protege" por
padrão, pensada pra parser que falhou em extrair um filtro existente, não
pra texto genuinamente irrestrito; precisa de um jeito de distinguir os
dois cenários).

---

## 2026-07-01 (5) - Claude

**Feito - substituição externa: gap real de parser achado e corrigido (6
cartas):** próximo item pedido pelo usuário. Antes de mergulhar, rodei um
agente de investigação pra confirmar se ainda tinha trabalho real (o item
do TODO.md tinha cara de já estar majoritariamente fechado em sessões
anteriores, igual aos outros achados stale de hoje).

**Confirmado**: a parte de executor/filtro JÁ estava fechada — `21 de 33`
steps com filtro estruturado, os 12 sem filtro são todos self-referentes
(sem bug de "fonte externa sem filtro protegendo qualquer alvo" —
`_target_matches_external_substitute` já bloqueia esse caso por padrão).
**Mas achei um gap real**: `parse_substitute_ko` e `parse_substitute_removal`
(`gerar_effects_db.py`) tinham listas de PADRÕES DE CUSTO paralelas mas
dessincronizadas — vários padrões existiam só numa das duas funções
(`return_own_don` só em removal; `trash this character instead`/`rest this
character instead` só em KO). 17 cartas reais com texto "would be
removed/K.O.'d ... instead" ficavam sem NENHUMA action `substitute_*`
parseada por causa disso.

**Corrigido**: unifiquei numa função só, `_parse_substitute_cost()`,
chamada pelas duas — união de todos os padrões + 2 bugs extras achados na
mesma auditoria: "you CAN [custo] instead" (regex só aceitava "you MAY") e
falta de variante power-or-less pro `trash_from_hand` (só existia
power-or-more, em duas redações de texto diferentes: "N power or less" e
"a power of N or less"). Fechei 6 das 17 cartas nesta fatia (as que reusam
custo/filtro já existente):
- **EB04-030, EB04-031**: `substitute_ko` self com `return_own_don`.
- **EB04-044**: `substitute_removal` self, só precisava do fix do verbo "can".
- **OP15-003**: `substitute_ko` self com `trash_from_hand` + `power_lte` novo.
- **OP12-027**: substituição EXTERNA (protege outro Character), precisou de
  um filtro de alvo novo — `filter_attribute` (Strike/Slash/Special/Wisdom/
  Ranged), plugado em `_target_matches_external_substitute`.
- **OP15-094**: substituição EXTERNA — achado bônus interessante: o
  early-return de `_apply_substitute_target_filters` via "this character"
  no assunto da frase descartava o filtro de TIPO inteiro quando o texto
  real era "X type Character OTHER THAN this Character" (tratando como
  self-target por engano). A exclusão de si mesma já é garantida
  estruturalmente pelo executor (`sources = [c for c in
  self.me.field_chars if c is not target]` em `try_any_substitute`), então
  só precisava parar de jogar fora o filtro nesse caso específico.

**Validação:** `python -m py_compile`; `python diff_parser.py` (`GANHOU=0
PERDEU=0`, 6 MUDOU = exatamente as 6 cartas esperadas); `python
gerar_dbs.py` + `python snapshot_parser.py`; `python smoke_test.py`
(102/102, 8 casos novos); `python smoke_test_broad.py` (40/40); `python
audit_replay.py --n 20 --seed 7` e `--n 15 --seed 99` (0 exceções, 0
anomalias nas duas).

**Ainda falta:** 13 cartas com custos genuinamente novos (não reusam nada
do que já existe): OP04-082, OP07-029 (mecânica invertida — rest 1
Character do OPONENTE como custo), OP10-034, OP10-037, OP11-110, OP12-061,
OP14-029, OP14-034 (externa), OP14-092, OP15-035 (externa), OP16-014, ST09-010,
ST20-002. Cada uma precisa de 1 cost-type novo em `_pay_substitute_cost` —
detalhado no TODO.md.

---

## 2026-07-01 (4) - Claude

**Feito - cannot_attack_self family: já estava implementado, só faltava
teste + limpar comentário enganoso:** depois de fechar `deck_reorder_rest`/
`deck_top_rest`, fui pro próximo item de maior leverage (mesmo bloqueador
estrutural dos "5 pontos de filtro de ataque" que tinha acabado de tocar):
`cannot_attack_self`/`cannot_attack_self_unless`/
`cannot_attack_own_characters_by_cost` (6 cartas, comentário inline no
código dizia "reconhecidas sem travar nada ainda").

**Achado:** essa família JÁ estava 100% implementada e funcionando.
`is_attack_locked_self()` (`decision_engine.py:609-672`) lê
`effects['passive']['steps']` direto de `get_card_effects()` — sem depender
de nenhum estado setado por `_execute_step` — e já é chamada nos 5 pontos
que filtram "pode atacar" (os mesmos que recebi `can_afford_attack_paywall`
na sessão anterior). Verifiquei diretamente: Oars (cannot_attack_self),
Trafalgar Law EB04-005 (unless + condição opp_chars_power_gte_count) e
Buggy P-084 (mass_lock_conditional por custo) já travam corretamente.

O placeholder em `_execute_step` (`if action in (...): return '(...nao
implementado...)'`) NÃO bloqueava nada — mas também não era código morto:
`apply_your_turn_buffs()` executa TODO step de `'passive'` via
`_execute_step` (não só buffs), então esse placeholder rodava todo turno
pra cada uma dessas 6 cartas, gerando um log confuso de "não implementado"
mesmo a trava real já estando ativa em paralelo via `is_attack_locked_self`.
Troquei o placeholder por um `return ''` silencioso e corrigi o comentário
pra explicar a situação real (evita que uma sessão futura tente
"reimplementar" algo que já funciona).

**Validação:** `python -m py_compile`; `python smoke_test.py` (90/90, 6
casos novos: `cannot_attack_self` incondicional, `unless` com condição
falhando/passando, mass-lock por custo travando/liberando/não-aplicando com
Leader errado); `python smoke_test_broad.py` (40/40); `python
audit_replay.py --n 20 --seed 7` e `--n 15 --seed 99` (0 exceções, 0
anomalias nas duas).

**Ainda falta:** substituição externa (família grande, ~38 textos),
auditoria de imunidade restante (`EffectImmune`/`CombatImmune`/
`ImmuneToStrikes`), itens de performance (`deepcopy` no Turn Planner, 5
funções órfãs), itens menores de parser (place-at-bottom-of-deck ~14,
opponent has N+ DON ~8), e rotação de chaves Supabase (segurança, antes de
deploy público).

---

## 2026-07-01 (3) - Claude

**Feito - implementa deck_reorder_rest / deck_top_rest (último item da
fila pedida pelo usuário):** os dois últimos stubs sem handler de execução.

**Achado importante:** `deck_top_rest` é um nome de action EQUIVOCADO do
parser. `gerar_effects_db.py:467-470` tem um `elif` que casa o PREFIXO
`'place the rest at the top'` antes de checar o sufixo `'or bottom'` —
então toda carta com o texto real "place the rest at the top or bottom of
the deck in any order" cai incorretamente em `deck_top_rest`. Verifiquei
diretamente em `cards_rows.csv`: nenhuma das 5 cartas que usam
`deck_top_rest` (OP02-057, OP05-043, OP08-053, OP11-040, OP11-104) tem
texto "place the rest at the top" SEM "or bottom" em seguida — são
exatamente o mesmo mecanismo de `deck_reorder_rest` (escolha livre de
ordem), só com nome diferente. Decidi não tocar o parser/regenerar os DBs
só por causa do nome — as duas actions agora compartilham o mesmo handler
em `_execute_step`.

**Implementação:** heurística mirando o `peek_life` 'all' já existente — a
IA controla a ordem livremente, então bota a carta mais valiosa de volta no
topo do deck (próxima a ser comprada), o resto ordenado por `board_value`
crescente abaixo dela. Também adicionadas a `safe_extra_actions` dos
Counter events — isso desbloqueia **OP01-088**, que tinha ficado de fora
explicitamente na fatia de Counter events de ontem por causa desse handler
faltando (documentado no HANDOFF.md (8) de 30/06).

**Validação:** `python -m py_compile`; `python smoke_test.py` (84/84, 3
casos novos: `deck_reorder_rest` puro, `deck_top_rest` com filtro, e
integração via Counter event OP01-088); `python smoke_test_broad.py`
(40/40); `python audit_replay.py --n 20 --seed 7` e `--n 15 --seed 99` (0
exceções, 0 anomalias nas duas).

**Estado da fila pedida pelo usuário (4 a 10 da lista original): TODOS
fechados.** 5 já estavam implementados (corrigido no TODO.md), 2
implementados nesta sessão (`lock_opp_attack_unless_pays` e
`deck_reorder_rest`/`deck_top_rest`). Itens reais ainda em aberto no
TODO.md: substituição externa (família grande), auditoria de imunidade
restante (`EffectImmune`/`CombatImmune`/`ImmuneToStrikes`), `cannot_attack_self`/
`cannot_attack_self_unless`/`cannot_attack_own_characters_by_cost` (6
cartas, mesmo bloqueador estrutural do `lock_opp_attack_unless_pays` — os
5 pontos de filtro "pode atacar" já foram tocados nesta sessão, então a
próxima implementação desses fica mais barata), e os itens de performance/
parser menores listados no TODO.md.

---

## 2026-07-01 (2) - Claude

**Feito - implementa lock_opp_attack_unless_pays (OP08-043 Edward.Newgate):**
primeiro dos 2 itens reais que sobraram da auditoria da fila anterior.
Character do oponente PODE atacar, mas o dono paga um custo (trash N cartas
da mão) a cada ataque enquanto a trava estiver ativa — distinto de
`cannot_attack_until` (bloqueio total, já implementado).

- Campo novo `Card.attack_paywall: dict` (`{cost_type, cost_amount, until}`)
  — adicionado ao `__deepcopy__` customizado de `Card` (campo dict sempre
  REASSIGNED, nunca mutado in-place, então compartilhar referência no
  deepcopy é seguro) e resetado em `refresh_phase` junto com
  `cannot_attack_until`.
- Execução do step seleciona TODOS os Characters do oponente no campo no
  momento (texto real confirma: "select all of your opponent's
  Characters", sem escolha — `count=99`).
- Novo helper `can_afford_attack_paywall(card, owner)`
  ([decision_engine.py:675](scriptis_da_ia/optcg_engine/decision_engine.py))
  — adicionado aos 5 pontos que já filtravam `not c.cannot_attack_until`
  como "pode atacar" (`my_attack_power`, geração de ações de ataque em 3
  lugares diferentes, Turn Planner). Simplificação deliberada: paga sempre
  que a mão tem cartas suficientes, sem modelar "vale a pena pagar" (a
  fase "Opponent Reading" mencionada no comentário antigo do código
  continua pausada — não reabri ela só por causa de 1 carta; mesmo padrão
  conservador que o resto do engine já usa pra custos de ativação).
- Pagamento real acontece em `_execute_attack`, logo depois de restar o
  atacante: trasha as N piores cartas da mão por `board_value()`.

**Validação:** `python -m py_compile`; `python smoke_test.py` (81/81, 4
casos novos: trava aplicada a todos os characters do oponente,
`can_afford_attack_paywall` com/sem paywall e mão insuficiente, e
integração real via `OPTCGMatch._execute_attack` confirmando o trash
automático); `python smoke_test_broad.py` (40/40); `python audit_replay.py
--n 20 --seed 7` e `--n 15 --seed 99` (0 exceções, 0 anomalias nas duas).

**Ainda falta:** `deck_reorder_rest`/`deck_top_rest` (2 actions distintas,
16+5 cartas) — próximo item da fila pedida pelo usuário.

---

## 2026-07-01 - Claude

**Feito - auditoria da "FILA ANTERIOR ainda aberta" do TODO.md:** usuário
pediu pra trabalhar os itens "choice", "conditional_stack", "set_base_power",
"lock_opp_attack_unless_pays", "deck_reorder_rest/deck_top_rest",
"plan_don_distribution" e "on_opponent_attack timing" em ordem. Antes de
implementar, rodei um agente de investigação (read-only) pra confirmar o
estado real de cada um no código, já que `on_opponent_attack timing` eu
sabia de antemão que estava stale (resolvido em 27/06, confirmado de novo
ontem). Resultado: **5 dos 7 itens já estavam implementados**, o TODO.md
só não tinha sido atualizado:

- `choice` (heurística de valor) — já implementado, `_resolve_choice`
  (`decision_engine.py:853-897`). Contagem real 17 cartas (TODO dizia 19).
- `conditional_stack` — já implementado (`decision_engine.py:1610-1613`).
  1 carta (OP15-092), confere com o TODO.
- `set_base_power` — já implementado, handler completo em
  `decision_engine.py:2512-2566` incluindo caso dinâmico. Contagem real 15
  cartas (TODO dizia 8 — dobrou).
- `plan_don_distribution` — já subtrai a reserva defensiva
  (`decision_engine.py:4720`), só ignora no modo LETHAL deliberadamente
  (decisão do usuário em 27/06).
- `on_opponent_attack timing` — já existe e já é executado, confirmado de
  novo.

Corrigi o TODO.md marcando os 5 como feitos com a contagem/localização real,
mantendo só os 2 itens genuinamente pendentes:
- `lock_opp_attack_unless_pays` (OP08-043, 1 carta) — placeholder não
  implementado em `decision_engine.py:2438-2439`.
- `deck_reorder_rest`/`deck_top_rest` — duas actions DISTINTAS sem handler
  de execução (`deck_reorder_rest`: 16 cartas; `deck_top_rest`: 5 cartas
  próprias — OP02-057, OP05-043, OP08-053, OP11-040, OP11-104).

**Ainda falta:** implementar esses 2 itens reais (próximo passo desta
sessão).

---

## 2026-06-30 (8) - Claude

**Feito - Counter events: buff + play_card/busca em deck (última fatia
desta sequência):** `play_card`, `play_from_deck`, `look_top_deck`,
`add_to_hand`, `deck_bottom_rest` já tinham handler genérico (usados em
on_play/trigger normalmente) — adicionados a `safe_extra_actions` como
bônus de valor junto de um buff `battle_only` que já defende sozinho.
Desbloqueia 8 das 9 cartas do grupo: EB01-019, EB02-059, OP02-045,
OP05-018, OP08-054, OP08-115, OP14-116, ST12-017.

**Achado novo (não corrigido, baixo impacto):** `deck_reorder_rest` (usado
só por OP01-088) é parseada e referenciada em `_step_is_viable`, mas
**nunca teve handler de execução** — mesmo padrão de bug do `debuff_power`
de uma sessão atrás, só que aqui afeta 1 única carta. Deixei de fora desta
fatia por ser baixo impacto; registrado no TODO.md pra não se perder.

**Deliberadamente fora de escopo:** os 4 Counter events sem nenhum buff que
só jogam/buscam carta (EB01-009, OP01-087, OP04-036, OP10-078) — não
afetam `defend_power`/`atk_power` de jeito nenhum, então não cabem no
framework "isso impede o hit". Exigiriam um critério de decisão diferente
("vale gastar DON/carta por puro valor, mesmo sem impedir o ataque?").

Cobertura final de Counter events com buff (depois de toda a sequência
desta sessão): **136/180** (começou em 102/180).

**Validação:** `python -m py_compile`; `python smoke_test.py` (76/76, 4
casos novos cobrindo play_card incondicional/condicional pass-fail e busca
em deck); `python smoke_test_broad.py` (40/40); `python audit_replay.py
--n 20 --seed 7` e `--n 15 --seed 99` (0 exceções, 0 anomalias nas duas).

**Estado final da auditoria de Counter events (encerrada por ora).** Ainda
fora de escopo, ver TODO.md para detalhes:
- `deck_reorder_rest` sem handler (1 carta, OP01-088).
- `bounce` puro (2, avaliado como fora de escopo em sessão anterior).
- `substitute_ko`/`immunity`/`negate_effect` combinados (4, mecânicas
  distintas que merecem auditoria própria).
- 3 cartas com semântica ambígua de alvo no debuff (OP02-089, OP04-017,
  OP09-097).
- 4 cartas puramente de busca/play sem buff (fora do framework atual).

---

## 2026-06-30 (7) - Claude

**Feito - KO via Counter event:** terceiro e último mecanismo de Counter
event desta sequência de auditoria, item que tinha ficado explicitamente
pendente no handoff anterior. 4 cartas ("[Counter] K.O. up to 1 of your
opponent's Characters with cost/power N or less[, rested only]" — EB01-010,
OP08-094, OP10-040, OP13-039) removem o atacante INTEIRAMENTE antes do dano,
cancelando o ataque por completo — não é uma redução de power como os dois
mecanismos anteriores (buff de defesa / debuff do atacante), é cancelamento
total.

Implementei `_counter_event_ko_plan` + `try_counter_event_ko_attacker` em
[decision_engine.py](scriptis_da_ia/optcg_engine/decision_engine.py),
chamadas no fluxo de `_resolve_attack` logo depois do debuff do atacante não
bastar e antes do Damage Step — se ativar, `return False` direto. Respeita
imunidade/substituição do atacante com a mesma checagem do `ko` genérico
(`ko_context='effect'`, já que isto é o efeito do Counter event, não dano em
combate). `rested_only` é satisfeito trivialmente porque o atacante já fica
`rested=True` ao declarar o ataque, bem antes do Counter Step rodar. Escopo
mínimo de novo: exige exatamente 1 step `ko` com `target='opp_character'` e
nenhum outro step.

**Validação:** `python -m py_compile`; `python smoke_test.py` (72/72, 4
casos novos cobrindo ativação por `power_lte`/`cost_lte`+`rested_only` e os
respectivos casos negativos); `python smoke_test_broad.py` (40/40); `python
audit_replay.py --n 20 --seed 7` e `--n 15 --seed 99` (0 exceções, 0
anomalias nas duas).

**Estado da auditoria de Counter events nesta sequência (encerrada por
ora):** dos 78 eventos `[Counter]` originalmente fora da heurística, agora
restam fora de escopo: `play_card`/`play_from_deck`/busca em deck (9
cartas, lógica de seleção mais complexa — próximo candidato natural se
alguém quiser continuar), `bounce` puro (2, avaliado como fora de escopo em
sessão anterior), `substitute_ko`/`immunity`/`negate_effect` combinados (4,
mecânicas distintas que merecem auditoria própria), e 3 cartas com semântica
ambígua de alvo no debuff (OP02-089, OP04-017, OP09-097).

---

## 2026-06-30 (6) - Claude

**Feito - Counter events que enfraquecem o ATACANTE:** mecânica nova,
distinta de tudo que já existia (que sempre buffava a PRÓPRIA defesa). 5
cartas no banco são "[Counter] Give up to 1 of your opponent's Leader or
Character cards -X power during this turn" (OP01-028, OP03-017, OP07-075,
OP15-021, ST09-014) — reduzem o `atk_power` do atacante diretamente.

Implementei `_counter_event_debuff_plan` + `try_counter_event_debuff` em
[decision_engine.py](scriptis_da_ia/optcg_engine/decision_engine.py),
chamada como fallback no fluxo de `_resolve_attack` logo depois que
`try_counter_event_power` (buff da própria defesa) não bastar sozinho —
`atk_power -= amount`, mutando `attacker.power_buff` de verdade (não é só
matemática local; o atacante fica realmente mais fraco pro resto do turno,
consistente com o texto "during this turn"). Escopo deliberadamente mínimo:
exige EXATAMENTE 1 `debuff_power` no bloco `counter` e nenhum outro step —
deixei de fora 3 cartas com semântica ambígua de alvo (OP02-089 "total of
2... -3000" com distribuição não clara, OP04-017 com 2 debuffs sequenciais
sem o marcador "that card" que o padrão de buff bonus usa, OP09-097 que
combina com `negate_effect`, ainda sem handler).

**Validação:** `python -m py_compile`; `python smoke_test.py` (68/68, 4 casos
novos cobrindo ativação, debuff insuficiente, mismatch de target_type
leader/character, e condição de vida no nível do block); `python
smoke_test_broad.py` (40/40); `python audit_replay.py --n 20 --seed 7` e
`--n 15 --seed 99` (0 exceções, 0 anomalias nas duas).

**Ainda falta (ver TODO.md):**
- **KO via Counter event** (4 cartas: EB01-010, OP08-094, OP10-040,
  OP13-039) — "[Counter] K.O. up to 1 of your opponent's Characters..."
  remove o atacante inteiramente ANTES do dano, cancelando o ataque por
  completo. É um mecanismo de cancelamento, não uma redução de power —
  precisa de um ponto de injeção próprio no fluxo de `_resolve_attack`
  (provavelmente logo após o Blocker), distinto dos dois mecanismos já
  implementados (buff da defesa / debuff do atacante).
- `play_card`/`play_from_deck`/busca em deck (9 cartas, lógica de seleção
  mais complexa).
- `bounce` puro (2, já avaliado como fora de escopo em sessão anterior).
- `substitute_ko`/`immunity`/`negate_effect` combinados (4, mecânicas
  distintas que merecem auditoria própria).

---

## 2026-06-30 (5) - Claude

**Feito - Counter events: duration='this_turn' + select_filtered:**
continuação direta da auditoria dos 44 eventos `[Counter]` sem nenhum
`buff_power(battle_only)`. Achei que 14 deles tinham um único `buff_power`
mas com `duration='this_turn'` em vez de `battle_only` — o planner exigia
`battle_only` estritamente e descartava esses casos.

1. **`this_turn` também conta como defesa de batalha**: o Counter Step só
   acontece DENTRO da resolução da batalha em curso, e o resto do engine já
   trata `'this_turn'`/`'battle_only'` de forma idêntica na limpeza (reset
   de `power_buff` no início do turno) — então restringir a `battle_only` era
   conservador demais sem necessidade. Ampliei o filtro em
   `_counter_event_power_plan`. Desbloqueia 5 cartas com `target` já
   suportado: OP04-037, OP04-076, OP06-017, OP09-039, OP13-077.
2. **Novo `target_rule='select_filtered'`**: as outras 9 cartas usam "Up to
   1 of your [Tipo] Leader or Character cards gains +X power" — o alvo é
   escolhido por filtro de tipo, não necessariamente o defensor. Validação
   importante: só conta como defesa válida se o **alvo real sob ataque**
   bater no `filter_type` (via `card_matches_filter`), senão a carta
   buffaria outro aliado qualquer que não impede o hit desta batalha
   especificamente. Desbloqueia EB03-029, EB04-019, EB04-029, OP07-018,
   OP14-117, OP15-038, OP15-074, OP15-075, OP15-076.

Cobertura de Counter events com buff `battle_only`/`this_turn` foi de
114/180 pra 128/180.

**Validação:** `python -m py_compile`; `python smoke_test.py` (64/64, 5 casos
novos cobrindo `this_turn` e `select_filtered` positivo/negativo); `python
smoke_test_broad.py` (40/40); `python audit_replay.py --n 20 --seed 7` e
`--n 15 --seed 99` (0 exceções, 0 anomalias nas duas).

**Ainda falta (ver TODO.md):** os 30 eventos `[Counter]` restantes — KO puro
(4), debuff puro do atacante (6+1 duplo), `play_card`/`play_from_deck`/busca
em deck (9, lógica de seleção mais complexa), `bounce` puro (2, já avaliado
como fora de escopo da rota defensiva em sessão anterior), `substitute_ko`/
`immunity`/`negate_effect` combinados (4, mecânicas distintas que merecem
auditoria própria) e alguns casos mistos únicos.

---

## 2026-06-30 (4) - Claude

**Feito - fatia de Counter events: 2º buff condicional + extras simples:**
voltei à auditoria original de Counter events (78 eventos `[Counter]` fora
da heurística antes desta sessão). Categorizei os 78 em: 44 sem nenhum
`buff_power(battle_only)` (padrões totalmente diferentes — KO puro, debuff
puro do atacante, etc., fora de escopo hoje), 8 com 2 `buff_power
(battle_only)`, e o resto com 1 buff + alguma extra ainda não suportada.

1. **8 cartas com 2 buffs `battle_only`** (EB03-020, OP04-095, OP05-114,
   OP06-038, OP07-035, OP07-095, OP11-059, OP12-098): conferi o texto real
   e confirmei que o padrão é sempre "Up to 1 of your Leader or Character
   cards gains +X power... Then, if [cond], **that card** gains an
   additional +Y power" — o 2º buff (`target='self'` no parser, na real
   "that card") é BÔNUS condicional ao MESMO alvo do 1º, não um alvo
   independente. Generalizei `_counter_event_power_plan` em
   [decision_engine.py](scriptis_da_ia/optcg_engine/decision_engine.py) pra
   somar quantos `buff_power(battle_only)` existirem, com a regra: o
   primeiro define o alvo (leader/own_character/leader_or_character), os
   demais só entram se `target='self'` e sua própria `conditions` passar.
2. **Extras simples desbloqueados**: `trash_from_deck_top`, `peek_life`,
   `add_from_trash`, `gain_life` adicionados a `safe_extra_actions` — todos
   já tinham handler genérico em `_execute_step`, sem seleção complexa.
   Desbloqueia OP03-054, OP03-055, OP08-096, ST07-016, ST13-017, OP11-097,
   OP12-115, ST09-015.

Cobertura de Counter events com buff `battle_only` foi de 102/180 pra
114/180.

**Validação:** `python -m py_compile`; `python smoke_test.py` (61/61, 9 casos
novos cobrindo multi-buff condicional/incondicional e os 4 extras novos);
`python smoke_test_broad.py` (40/40); `python audit_replay.py --n 20 --seed
7` (0 exceções, 0 anomalias).

**Ainda falta (ver auditoria completa no TODO.md):** os 44 eventos `[Counter]`
sem nenhum `buff_power(battle_only)` (padrões mecanicamente diferentes:
KO/debuff/bounce puro do atacante, draw/buscas isoladas) e `play_card`/
`play_from_deck`/`look_top_deck`+`add_to_hand` (9 cartas, busca mais
complexa) continuam fora da heurística atual.

---

## 2026-06-30 (3) - Claude

**Feito - implementa `debuff_power` (achado durante auditoria de Counter
events) + corrige power negativo:** ao auditar a fatia seguinte de Counter
events (extras agressivos/estado complexo), achei que `debuff_power` nunca
teve handler de execução em `_execute_step` — só era reconhecido em
`_step_is_viable` e em heurísticas de score. Era no-op silencioso em **142
steps reais** no banco, em quase todos os timings (on_play, when_attacking,
main, activate_main, counter, trigger, on_opp_attack, etc.), não só Counter
events. Perguntei ao usuário se queria escopo pequeno (pular debuff_power) ou
corrigir a causa raiz — escolheu corrigir.

1. Implementado `if action == 'debuff_power':` em
   [decision_engine.py](scriptis_da_ia/optcg_engine/decision_engine.py),
   espelhando `buff_power` só que no lado do oponente. 4 targets reais:
   `opp_character`/`opp_leader_or_character` (alvo mais valioso via
   `choose_highest_board_value`, cai no Leader se o campo do oponente está
   vazio), `all_opp_characters`, `opp_leader`. Parser nunca emite
   filtro/count pra esses alvos — sempre 1 escolha automática da IA.
2. Adicionado `debuff_power` em `safe_extra_actions` dos Counter events
   (objetivo original da fatia) — desbloqueia OP08-017, OP10-018, OP12-018,
   ST29-015 (buff de batalha + debuff do atacante).
3. **`audit_replay.py` pegou um bug real na primeira rodada**: Characters
   ficando com power negativo (Otama, Jozu) — `effective_card_power()`
   (`rules_facade.py`) não tinha piso em 0. Corrigido com `max(0, ...)`.

**Validação:** `python -m py_compile`; `python smoke_test.py` (50/50, 6 casos
novos cobrindo os 4 targets de debuff_power + integração real com OP10-018);
`python smoke_test_broad.py` (40/40); `python audit_replay.py --n 5 --seed
42` (0 anomalias, depois do fix do power negativo) e `--n 20 --seed 7` (0
exceções, 0 anomalias, amostra maior por ser mudança ampla).

**Ainda falta:** a fatia original de Counter events (extras agressivos:
`play_card`, buscas/topdeck, múltiplos buffs no mesmo evento) continua
pendente — esta sessão desviou pra consertar o achado de `debuff_power`
antes. Ver TODO.md para a lista completa de extras ainda não suportados (78
eventos `[Counter]` fora da heurística atual).

---

## 2026-06-30 (2) - Claude

**Feito - auditoria de OP11-005/OP11-046 + 2 bugs corrigidos:** a pendência
"variantes não parseadas como OP11-005/OP11-046" do HANDOFF anterior era na
verdade um bug de parser, não um caso novo de regra.

1. **Bug do parser (`gerar_effects_db.py`):** `'blocker'` está em
   `TODAS_TAGS` (delimitador para os OUTROS blocos pararem em `[Blocker]`),
   mas não tem `trigger_pattern` próprio. Texto que vem DEPOIS do parêntese
   de regra do Blocker era descartado por inteiro — nenhum dos 3 caminhos de
   fallback cobria esse caso. Afetava 4 cartas: OP11-005 (imunidade KO
   condicionada a DON x1 contra Characters sem Special), OP11-046 (imunidade
   KO condicionada a "só ter Characters GERMA"), OP11-088 (buff de
   counter-attack) e ST10-014 (draw/trash). Corrigido com um novo segmento
   "pós-Blocker" em `parse_card_effect`.
2. **Bug de condição nunca checada:** a condição `only_field_type` ("if you
   only have Characters with type X") era parseada desde 29/06/2026 mas
   NUNCA era lida nem por `_check_conditions` (EffectExecutor) nem por
   `_immunity_conds_met` (caminho específico de imunidade) — o efeito era
   tratado como incondicional. Afetava as 6 cartas que já usavam essa
   condição (EB02-010, OP05-084, OP05-092, OP13-097, OP15-001, OP16-022)
   além da nova OP11-046. Ambos os checkers agora respeitam `only_field_type`.

**Validação:** `python -m py_compile`; `python diff_parser.py` (`GANHOU=0
PERDEU=0`, 4 MUDOU = exatamente as 4 cartas esperadas); `python gerar_dbs.py`
+ `python snapshot_parser.py`; `python smoke_test.py` (45/45, com 7 casos
novos cobrindo os dois bugs); `python smoke_test_broad.py` (40/40); `python
audit_replay.py --n 5 --seed 42` (0 anomalias — turnos mudaram em 2 das 5
partidas, esperado já que comportamento real mudou).

**Ainda falta:** a família grande de substituição externa (eventos
`[Counter]` com efeitos extras agressivos/estado complexo) é a próxima fatia
combinada com o usuário.

---

## 2026-06-30 - Claude

**Feito - imunidade KO em batalha por atributo/fonte do atacante:** próxima
fatia da pendência deixada pela sessão anterior. `_source_matches_battle_ko_immunity()`
(novo) compara a sentença de imunidade (extraída por `_ko_sentence()`, fatorado
de `_ko_immunity_applies_to_context()`) com o atacante (`source_card`) para os
padrões "by Leaders", "by Characters without [Special]" e "by [Strike/Slash/
Special/Wisdom/Ranged] attribute Characters". `is_immune()` e o caminho de KO em
combate (`OPTCGMatch`) agora passam `source_card=attacker`.

**Validação:** `python -m py_compile scriptis_da_ia\smoke_test.py
scriptis_da_ia\optcg_engine\decision_engine.py`; `python
scriptis_da_ia\smoke_test.py` (38/38); `python smoke_test_broad.py` (40/40);
`python audit_replay.py --n 5 --seed 42` (0 anomalias).

**Ainda falta:** variantes de imunidade não parseadas como `immunity` ainda
(ex.: OP11-005/OP11-046), e a família grande de substituição externa (ver
seção de dívida técnica no TODO.md).

## 2026-06-30 - Codex

**Feito - imunidade KO por contexto:** `is_immune()` agora recebe `ko_context`
para diferenciar KO por efeito (`effect`) de KO em batalha (`battle`). O helper
usa o texto bruto da carta para impedir que `cannot be K.O.'d in battle`
proteja contra efeitos, e que `cannot be K.O.'d by effects` proteja contra
combate. Chamadores principais atualizados: executor de KO por efeito e
resolucao de combate.

**Validacao:** `python -m py_compile scriptis_da_ia\smoke_test.py
scriptis_da_ia\optcg_engine\decision_engine.py`; `python
scriptis_da_ia\smoke_test.py`; `python audit_replay.py --n 5 --seed 42`;
`python smoke_test_broad.py` (40/40).

**Ainda falta:** imunidade por atributo/fonte do atacante (`Strike`, `Slash`,
`Special`, `Leaders`) e variantes que o parser ainda nao transformou em
`immunity` (ex.: OP11-005/OP11-046).

## 2026-06-29 23:35 - Codex

**Update posterior - Counter buff simples:** implementada a primeira fatia de
execucao de eventos `[Counter]`: eventos com um unico `buff_power` defensivo
(`battle_only`) agora podem ser usados no Counter Step se o buff sozinho impedir
o hit. A selecao escolhe o evento suficiente com menor excesso de power, respeita
DON disponivel, custos simples de `trash_from_hand` e condicoes `leader_type`.
Auditoria antes da implementacao encontrou 70 eventos nesse formato. Smoke cobre:
buff no leader, custo extra de trash, target leader-only recusando Character e
condicao `leader_type` errada/certa.

**Update posterior - Counter draw + buff:** o helper de Counter agora aceita
blocos com um unico buff defensivo `battle_only` mais steps `draw` seguros. O
draw e executado depois de pagar o evento/custos e respeita condicoes no step.
Smoke cobre `draw + buff`, `buff + draw` condicional falhando e passando.

**Update posterior - Counter set/rest + buff:** o helper tambem aceita extras
seguros `set_active` e `rest_opp_character` junto de um unico buff defensivo
`battle_only`. Smoke cobre `OP01-057` reativando Character proprio e `OP01-058`
restando Character do oponente. Validado com broad `40/40` e audit replay sem
anomalias.

**Update posterior - Counter DON + buff:** implementado executor para `add_don`
e o helper de Counter passou a aceitar extras seguros `add_don` e
`set_don_active`. Smoke cobre `OP01-119` adicionando DON ativo com condicao de
vida, a mesma carta sem a condicao ativa, e `ST02-016` reativando DON rested.

**Update posterior - Counter removal + buff:** o helper de Counter tambem aceita
extras de remocao simples junto de um unico buff defensivo: `ko`, `bounce` e
`place_opp_character_bottom_deck`. Na base atual isso habilita KO+buff e
bottom-deck+buff; bounce existente e puro e segue fora da rota defensiva. Smoke
cobre `OP01-026`, `OP04-057` e garante que `ST03-016` (bounce puro) nao ativa.

**Update posterior - EB02-030:** implementado suporte estreito para Counter event
com `counter -> substitute_ko` e custo `trash_from_hand` no K.O. em batalha.
Hoje so existe 1 caso no banco (`EB02-030`). O evento agora exige DON suficiente,
vai para o trash, trasha 1 carta da mao e preserva o Character alvo. Smoke cobre
ativacao e bloqueio por DON insuficiente.

**Feito** - primeira fatia de substituição externa no executor:
- `try_any_substitute()` tenta primeiro a substituição do próprio alvo e depois
  procura fontes aliadas em campo, leader e stage.
- Fontes externas só protegem quando o step/bloco tem filtro de alvo
  estruturado (`filter_type`, `filter_name`, custo/power/rested ou condições
  target-like). Isso evita que cartas cujo parser perdeu filtro passem a
  proteger qualquer coisa por acidente.
- Caminhos de KO/removal por efeito e KO em combate agora chamam
  `try_any_substitute()`.
- Custo `rest_self_and_trash_hand` foi adicionado para substituições externas
  já parseadas nesse formato.
- Smoke novo cobre fonte externa protegendo alvo filtrado e recusando alvo fora
  do filtro.

**Parser/data coverage nesta fatia:** `gerar_effects_db.py` agora extrai filtros
do alvo protegido em substituições quando o sujeito da frase é claro. Exemplos
confirmados no banco regenerado: Monster ganhou `filter_name=bonk punch`,
Tashigi ganhou `filter_color=green` + `exclude=tashigi`, Sabo ganhou
`cost_lte=7` + `exclude=sabo`, Rosinante OP12-048 ganhou `filter_type=navy` +
`filter_color=blue`; ST30-009/ST30-011 ganharam `power_eq=6000`.
Resultado da auditoria rápida: 21 de 33 steps de
substituição têm filtro de alvo estruturado.

**Limite consciente:** ainda não fecha 100% das 38 cartas reais; faltam variantes
sem filtro extraível pelo sujeito simples e validação carta-a-carta em replay.

**Auditoria pós-commit dos 12 sem filtro:** 10/12 são `this Character`, então
estão corretos sem filtro externo porque o executor tenta primeiro a substituição
do próprio alvo. `OP07-042` também é self, mas o sujeito vem composto com
condição de leader; não precisa de mudança de comportamento. O único caso
conceitualmente diferente é `EB02-030`, que é evento `[Counter]` protegendo
`any of your Characters` em batalha. O motor ainda não executa Counter events
como efeitos, só soma counter impresso da mão; isso deve virar uma fatia própria.

**Validação:**
- `python -m py_compile scriptis_da_ia\smoke_test.py scriptis_da_ia\optcg_engine\decision_engine.py` passou.
- `python scriptis_da_ia\smoke_test.py` passou.
- `python audit_replay.py --n 5 --seed 42` passou com 0 anomalias.
- `python smoke_test_broad.py` passou `40/40`.

---

Regra: antes de parar (créditos, fim de sessão, etc.), escreva um bloco novo
no TOPO deste arquivo com data/hora, o que foi feito, e o que falta. Quem
assumir a sessão seguinte deve ler este arquivo + rodar `git log --oneline -10`
e `git status` antes de tocar em qualquer coisa.

---

## 2026-06-29 23:11 — Codex

**Feito** — auditoria de imunidade/substituição por texto bruto:
- 220 cartas batem em padrões amplos (`cannot be K.O.'d`, `cannot be removed`,
  `would be removed/K.O.'d`, `instead`, etc.).
- `substitution_text_without_substitute_action = 0`: todo texto com padrão
  claro de substituição já tem alguma action estruturada (`substitute_ko` ou
  `substitute_removal`) ou foi classificado em outra mecânica.
- `extra_steps` em substituição existia no banco para 2 cartas (`OP08-045`
  Thatch e `ST30-009` LittleOars Jr.), mas o executor pagava o custo e ignorava
  o efeito extra. Corrigido: após pagar a substituição, `_execute_step()` roda
  cada `extra_step`. Smoke novo valida `trash_self + draw`.

**Achado importante ainda aberto:** substituições por FONTE EXTERNA. Há cerca de
38 textos do tipo "if your [outro] Character would be removed/K.O.'d, you may
[fazer algo com esta carta/leader/mão] instead". O engine atual chama
`try_substitute(target, ...)`, então ele olha principalmente os efeitos do alvo,
não de aliados/líder que poderiam proteger o alvo. Corrigir isso exige separar
explicitamente `target` e `source` no executor; não é só regex.

**Validação:**
- `python -m py_compile scriptis_da_ia\smoke_test.py scriptis_da_ia\optcg_engine\decision_engine.py` passou.
- `python scriptis_da_ia\smoke_test.py` passou.
- `python audit_replay.py --n 5 --seed 42` passou com 0 anomalias.
- `python smoke_test_broad.py` passou `40/40`.

**Próximo:** implementar substituição externa com assinatura do tipo
`try_substitute(target, removal_kind, source=None)` ou método novo que procura
fontes protetoras no campo/líder, aplicando custo no `source` e efeito no
`target` quando o texto diz "that Character".

**Estado após esta fatia:** esperado commit/push com
`scriptis_da_ia/optcg_engine/decision_engine.py`, `scriptis_da_ia/smoke_test.py`,
`HANDOFF.md` e `TODO.md`.

---

## 2026-06-29 23:01 — Codex

**Feito** — primeira fatia do sistema de imunidade. A auditoria mostrou que a
família não estava mais "inteira ausente": há 52 `action='immunity'` parseadas
no banco (`ko`: 41, `removal`: 11), e os caminhos principais de KO/removal já
consultavam `is_immune()` (KO/trash por efeito, bounce, bottom deck e KO em
combate).

**Bug corrigido:** em `ko`/`trash` com `target='all_character'`, a engine sempre
passava `source_is_opp=True`. Isso fazia imunidade "by opponent's effects"
proteger também contra efeitos próprios, o que é errado. Agora `source_is_opp`
é calculado por dono do alvo: se meu efeito remove meu próprio personagem, não
conta como efeito do oponente.

**Validação:**
- `python -m py_compile scriptis_da_ia\smoke_test.py scriptis_da_ia\optcg_engine\decision_engine.py` passou.
- `python scriptis_da_ia\smoke_test.py` passou, com testes diretos para:
  imunidade `source=opp` não proteger contra KO próprio; e proteger contra KO
  vindo do oponente.
- `python audit_replay.py --n 5 --seed 42` passou com 0 anomalias.
- `python smoke_test_broad.py` passou `40/40`.

**Próximo:** continuar imunidade, mas agora como cobertura/variantes: auditar
textos de `EffectImmune`, `CombatImmune`, `ImmuneToStrikes`, e substituições
"would be removed/K.O.'d ... instead" que podem ainda estar fora de `immunity`
ou parcialmente em `substitute_*`.

**Estado após esta fatia:** esperado commit/push com
`scriptis_da_ia/optcg_engine/decision_engine.py`, `scriptis_da_ia/smoke_test.py`,
`HANDOFF.md` e `TODO.md`.

---

## 2026-06-29 22:53 — Codex

**Feito** — `can_lethal_this_turn` deixou de espiar counters reais da mão oculta
do oponente. A análise agora usa:
- cartas reveladas na mão (`known_hand_cards`) pelo counter real;
- slots ocultos apenas por tamanho de mão, com a mesma densidade típica já usada
  por `opp_counter_potential`;
- chunks de 1000 para ser conservador a favor da defesa.

**Validação:**
- `python -m py_compile scriptis_da_ia\smoke_test.py scriptis_da_ia\optcg_engine\decision_engine.py` passou.
- `python scriptis_da_ia\smoke_test.py` passou, incluindo regressão que compara
  mão oculta com counter real vs mão oculta sem counter: resultado igual.
- `python audit_replay.py --n 5 --seed 42` passou com 0 anomalias.
- `python smoke_test_broad.py` passou `40/40`.

**Próximo:** sistema de imunidade, na ordem combinada. Primeiro mapear actions
`immunity` já parseadas e todos os pontos de remoção/KO/combate que precisam
consultar `is_immune`.

**Estado após esta fatia:** esperado commit/push com
`scriptis_da_ia/optcg_engine/decision_engine.py`, `scriptis_da_ia/smoke_test.py`,
`HANDOFF.md` e `TODO.md`.

---

## 2026-06-29 22:48 — Codex

**Feito** — fechados os 2 erros visíveis de replay que abririam a fila:
- `_choose_to_trash` deixou de descartar "evento sem trigger de menor custo" às
  cegas. Agora usa valor situacional (`DecisionEngine.avaliar_carta`) com bônus
  para evento defensivo/removal/search/draw. Isso preserva `Ground Death` quando
  há descarte realmente pior na mão.
- Five Elders com Mary Geoise: confirmado que o custo efetivo é 9, mas a reserva
  defensiva de DON tirava a carta da lista de ações antes do planner comparar.
  Agora corpos premium (`cost >= 8` ou `power >= 9000`) podem disputar o uso do
  DON reservado; o planner ainda decide se a linha vale.

**Validação:**
- `python -m py_compile scriptis_da_ia\smoke_test.py scriptis_da_ia\optcg_engine\decision_engine.py` passou.
- `python scriptis_da_ia\smoke_test.py` passou, com regressões novas para
  Ground Death e Five Elders/Mary Geoise.
- `python audit_replay.py --n 5 --seed 42` passou com 0 anomalias.
- `python smoke_test_broad.py` passou `40/40`.

**Próximo:** seguir a ordem combinada: `can_lethal_this_turn` não deve ler a mão
real do oponente para estimar counters; precisa usar informação conhecida ou
estimativa/modelo.

**Estado após esta fatia:** esperado commit/push com
`scriptis_da_ia/optcg_engine/decision_engine.py`, `scriptis_da_ia/smoke_test.py`,
`HANDOFF.md` e `TODO.md`.

---

## 2026-06-29 13:17 — Codex

**Feito** — reduzida a quantidade de simulações por decisão no Turn Planner sem
voltar ao modo guloso. `main_phase()` continua olhando até `TOP_K=6`, mas agora
sempre simula as 3 melhores ações e só inclui a 4ª-6ª se estiverem a até 180
pontos da melhor ação imediata. Também evita gerar amostras Monte Carlo quando
só existe uma candidata.

**Validação/performance:**
- `python -m py_compile scriptis_da_ia\optcg_engine\decision_engine.py` passou.
- `python scriptis_da_ia\smoke_test.py` passou.
- `python audit_replay.py --n 5 --seed 42` passou com 0 anomalias.
- `python smoke_test_broad.py` passou `40/40` em ~86s.
- `python audit_replay.py --n 10 --seed 42` passou com 0 anomalias em ~17.3s
  (antes desta fatia: ~24.2s na mesma medição curta).

**Observação:** esta é uma poda conservadora por score, não uma prova de ótima
jogada. O risco residual é alguma 4ª-6ª ação com score imediato baixo produzir
linha futura muito melhor; por isso mantive no mínimo 3 candidatas e uma janela
generosa.

**Estado após esta fatia:** esperado commit/push com
`scriptis_da_ia/optcg_engine/decision_engine.py`, `HANDOFF.md` e `TODO.md`.

---

## 2026-06-29 13:11 — Codex

**Feito** — adicionada cópia manual de `GameState.__deepcopy__` para o Turn
Planner. `Card` já tinha clone customizado; `GameState` ainda usava o caminho
genérico do dataclass. A nova cópia replica zonas, flags e contadores de forma
explícita e preserva referências internas via `memo` (ex: `end_of_turn_queue`
apontando para uma carta também presente em uma zona).

**Validação/performance:**
- `python -m py_compile scriptis_da_ia\optcg_engine\decision_engine.py` passou.
- `python scriptis_da_ia\smoke_test.py` passou.
- Teste direto de alias em `end_of_turn_queue` passou.
- `python audit_replay.py --n 5 --seed 42` passou com 0 anomalias.
- `python smoke_test_broad.py` passou `40/40` em ~144s.
- `python audit_replay.py --n 10 --seed 42` passou com 0 anomalias em ~24.2s
  (antes desta fatia: ~31.5s na mesma medição curta).

**Observação:** ainda não é a solução final do planner. O clone ficou mais
barato, mas `_simulate_sequence*` continua clonando muitos estados. Próxima
fatia estrutural deve reduzir quantidade de clones ou reaproveitar avaliação
de estados, não aumentar complexidade de regras.

**Estado após esta fatia:** esperado commit/push com
`scriptis_da_ia/optcg_engine/decision_engine.py`, `HANDOFF.md` e `TODO.md`.

---

## 2026-06-29 02:28 — Codex

**Feito** — aplicada uma otimização estrutural pequena no Turn Planner:
`_generate_and_score_actions()` agora calcula a reserva defensiva de DON uma vez
por estado e passa `don_usable` para `_can_play_card()`, em vez de recalcular
`_don_reserve_for_defense()` para cada carta da mão. Também reaproveita a
`analysis_priority()` já calculada ao gerar ações de anexar DON.

**Validação/performance:**
- `python -m py_compile scriptis_da_ia\optcg_engine\decision_engine.py` passou.
- `python scriptis_da_ia\smoke_test.py` passou.
- `python audit_replay.py --n 5 --seed 42` passou com 0 anomalias.
- `python smoke_test_broad.py` passou `40/40` em ~144s.
- `python audit_replay.py --n 10 --seed 42` passou com 0 anomalias em ~31.5s.

**Observação importante:** isso não elimina a dívida principal. O gargalo grande
continua sendo o uso pesado de `deepcopy` dentro de `_simulate_sequence*`; esta
mudança só remove recomputação repetida dentro do mesmo estado.

**Estado atual:** mudança ainda não commitada. Working tree deve ter
`scriptis_da_ia/optcg_engine/decision_engine.py`, este `HANDOFF.md` e `TODO.md`
se a nota de TODO for mantida.

---

## 2026-06-29 17:30 — Codex

**Feito** — investigada a lentidão pós-fechamento dos 5 gaps médios. `cProfile`
mostrou que o gargalo não era uma action nova isolada, e sim explosão do Turn
Planner: `_simulate_sequence`/`_simulate_sequence_once` chamavam milhares de
`deepcopy`, amplificado por `TOP_K=6`, `n_monte_carlo=20`, `max_steps=12`.

**Mudança aplicada:** reduzido o orçamento do planner para `max_steps=8` e
`n_monte_carlo=6`. Isso mantém o planner avaliando linhas, mas reduz o número
de simulações/deepcopies por decisão.

**Validação/performance:**
- Antes: 10 partidas aleatórias equivalentes ao broad levaram ~289s; broad 40
  não fechava em 300s.
- Depois: 10 partidas aleatórias fecharam em ~78s; `smoke_test_broad.py` fechou
  `40/40` em ~151s.
- `smoke_test.py` passou.
- `audit_replay.py --n 5 --seed 42` passou com 0 anomalias.
- Perfil de 1 partida caiu de ~24.6s para ~11.8s.

**Estado atual:** commitado e enviado em `9330cc7 Reduz custo do Turn Planner`.

**Próximo:** investigar otimização estrutural de verdade: reduzir `deepcopy` no
planner antes de mexer em qualidade de decisão.

---

## 2026-06-29 17:00 — Codex

**Feito** — fechados os 5 gaps médios que sobravam no cruzamento com o
simulador oficial:
- `PeekSelfLife/OppLife`: parser gera `peek_life`; engine olha/reordena Life
  própria ou do oponente.
- `TrashAllFaceUpLife`: adicionado `Card.life_face_up`; `gain_life` marca
  face-up/face-down; `turn_life_face_up/down` e `trash_own_life face='up'`
  executam a mecânica; face limpa quando a carta sai da Life.
- `ForceOpponent`: escolhas com "Your opponent chooses one" agora carregam
  `choice_chooser='opponent'`; `opp_bounce_own_character` respeita escolha do
  oponente/filtro de custo; `opp_choose_trash_our_hand` cobre Kanjuro-like.
- `QueueUpEndOfTurnAction/OppMainPhase`: adicionado
  `GameState.end_of_turn_queue` + `OPTCGMatch.end_phase()`. Cobre `set_active`,
  `set_don_active`, `gain_life` marcados com `timing='end_of_turn'` e Black
  Maria (`return_don_until_match_opp`). OppMainPhase ficou sem carta real
  prioritária no pool atual.
- `FieldCantAttackLeader`: `cannot_attack_leader_this_turn` bloqueia geração e
  execução direta de ataques ao Leader durante o turno.

**Validado:** `python -m py_compile gerar_effects_db.py optcg_engine\decision_engine.py`;
`python gerar_dbs.py`; `python snapshot_parser.py`; `python smoke_test.py`;
`python audit_replay.py --n 5 --seed 42`; teste direto dos 5 gaps. `smoke_test_broad.py`
completo não terminou em 300s; teste equivalente com 10 partidas aleatórias
terminou sem exceção, mas lento (~289s). Isso é o principal risco a observar.

**Próximo:** investigar a regressão/perfil de performance antes de confiar em
simulações massivas. Dívida grande de imunidade continua fora desta fatia.

---

## 2026-06-29 03:00 — Claude

**Feito** — 2 itens rápidos pedidos pelo usuário pra fechar a sessão:
- **Removido `_main_phase_OLD_fixed`** (`decision_engine.py`) — versão
  antiga de `main_phase`, de antes do Turn Planner existir, confirmada
  como dead code (`grep` não achou chamada em lugar nenhum fora da
  própria definição). Tinha um bug de conservação de DON, mas nunca
  executava em produção. Removida só por higiene.
- **Formalizado `audit_replay.py`** como ferramenta permanente em
  `scriptis_da_ia/audit_replay.py` (antes vivia só no scratchpad da
  sessão anterior). Limpei a instrumentação de debug específica daquela
  investigação (os monkeypatches de rastreamento de `_attach_don_for_attack`/
  `_apply_action` que já cumpriram seu papel) e deixei só as checagens de
  invariante reutilizáveis: conservação de DON (com detector de
  duplicata por `id()` em `field_chars`), power negativo, conservação de
  contagem de cartas. Uso: `python audit_replay.py [--n N] [--seed S]`,
  sai com exit code 1 se achar exceção ou anomalia (dá pra plugar num
  CI/hook no futuro se quiser). Validado: roda limpo (25/25, 0 anomalias,
  exit 0) e `smoke_test.py`/`smoke_test_broad.py` continuam 100%/40-40
  depois da remoção do dead code.

**Estado atual:** tudo commitado e pushed, working tree limpo, sem
pendências da sessão de hoje além do que já está listado em `TODO.md`.

**Próximo:** 5 "médios" restantes sem urgência (PeekLife,
TrashAllFaceUpLife, ForceOpponent, QueueUpEndOfTurnAction/OppMainPhase,
FieldCantAttackLeader); sistema de imunidade (dívida consciente, fora de
escopo).

---

## 2026-06-29 02:30 — Claude

**Feito** — item 3 do plano do usuário ("vamos fazer 1, depois 2 e depois
3"): auditoria via partida real instrumentada (não a lista teórica de
gaps). Encontrei e corrigi um bug real de integridade de estado:

- Construí um harness de auditoria (`audit_replay.py`, scratchpad, **não
  versionado**) que roda N partidas reais (decks de `decklists_raw.csv`)
  via `ReplayMatch`/`OPTCGMatch` e checa por turno: conservação de DON
  (`don_available + don_rested + don_attached_em_campo == 10 - don_deck`),
  power negativo, conservação de contagem de cartas.
- 25 partidas (seed=42) acharam 2 com violação de conservação de DON. Causa
  raiz: `Card` é `@dataclass` SEM `eq=False` → `__eq__`/`__hash__` por
  VALOR (todos os campos), o que faz `list.remove(card)`/`card in lista`
  ficarem ambíguos quando 2+ cópias físicas da MESMA carta com o MESMO
  estado coexistem na mesma zona (ex: 2 cópias recém-compradas na mão) —
  `.remove()` pode remover a cópia IRMÃ em vez da exata, deixando a carta
  realmente jogada ainda na mão; o Turn Planner a re-seleciona numa
  iteração seguinte e a joga DE NOVO, resultando no MESMO objeto Python
  duas vezes em `field_chars` (board_value e DON contados em dobro).
- **Por que não é um fix trivial de `eq=False`**: `_remap_action`
  (`decision_engine.py` ~5064, Turn Planner) usa `.index(obj)` para mapear
  uma ação do estado real pro clone (deepcopy) — isso DEPENDE de
  comparação por valor pra funcionar (objetos pós-deepcopy nunca são `is`
  o original). Mudar `Card` pra identidade quebraria isso por completo
  (todo remap falharia com `ValueError`, zerando a pontuação de toda ação
  simulada pelo Turn Planner).
- **Fix aplicado**: 2 helpers de identidade (`remove_by_identity`,
  `contains_identity`, logo antes de `remove_character_from_field`,
  `decision_engine.py` ~linha 591) + ~35 call sites de `.remove(card)`/
  `in`/`not in` trocados de comparação por valor pra `is`, em TODAS as
  operações que removem/checam uma carta DENTRO de um único estado (mão,
  campo, trash, deck, listas de candidatos temporárias). `_remap_action`
  ficou intocado de propósito.
- Validação: `smoke_test.py` 100%, `smoke_test_broad.py` 40/40, e
  re-rodei `audit_replay.py` com o MESMO seed=42 → **0 anomalias, 0
  exceções** nas 25 partidas (antes: 6 anomalias em 2 partidas).
- Documentado em `TODO.md` (seção nova "29/06/2026 — bug de identidade em
  `Card`"). Detalhes completos da reprodução lá.

**Estado atual:**
- Commit `ffc6a22` (tasks 1+2 da sessão anterior) ainda não pushed.
- Pendente de commit: `scriptis_da_ia/optcg_engine/decision_engine.py`
  (o fix de identidade), `TODO.md`.
- `audit_replay.py` vive só no scratchpad da sessão — não foi trazido pro
  repo. Se for útil como ferramenta permanente de auditoria, é um
  candidato pra uma sessão futura decidir se formaliza em
  `scriptis_da_ia/` (não fiz essa chamada aqui, escopo era só achar e
  corrigir bugs).

**Próximo:**
- Commitar e dar push (item 3 concluído, plano original dos 3 itens
  fechado).
- 5 "médios" restantes sem urgência (PeekLife, TrashAllFaceUpLife,
  ForceOpponent, QueueUpEndOfTurnAction/OppMainPhase, FieldCantAttackLeader).
- Sistema de imunidade — dívida consciente, fora de escopo.

---

## 2026-06-29 01:00 — Claude

**Feito** (plano em 3 partes pedido pelo usuário: 1. import quebrado, 2. um
gap "médio", 3. auditoria via replay — completei 1 e 2 nesta sessão):
- **1. Corrigido o import quebrado de `simular_deck_usuario.py`** (mencionado
  como dívida pendente em handoffs anteriores). Era de fato `parse_card_effects`
  vs `parse_card_effects_basic` (o nome certo). Rename simples no import e no
  único call site. Validado rodando o script até a etapa de Supabase (carrega
  2614 cartas normalmente, só falha depois por falta de credencial — esperado
  neste ambiente local).
- **2. Implementado `MatchLeaderToBasePower`** (escolhido entre os 6 "médios"
  por ter o maior número de cartas reais confirmadas — 13 cartas via
  levantamento por regex no `cards_rows.csv`, contra ≤11 dos outros). Novo
  campo `source` em `set_base_power`: quando presente, o `amount` é calculado
  em tempo de execução via `effective_power()` da carta referenciada, em vez
  do `int(amount)` fixo do banco (gap real confirmado:
  `decision_engine.py` antigo comentário dizia até estar "pendente sessão
  dedicada" pra ativar `base_power_override` no `effective_power()` — achei
  que isso já estava implementado há tempo, comentário estava desatualizado;
  corrigido o comentário também).
  - 3 fontes: `opp_leader` (5 cartas), `own_leader` (1 carta),
    `selected_opp_character` (2 cartas — seleção e cópia no MESMO step de
    texto, não precisa da infra de memória entre steps da rodada anterior).
  - Fica de fora: OP04-069 ("the same as the power of your opponent's
    ATTACKING Leader or Character") — exige saber quem está atacando no
    momento da resolução, contexto de batalha que `set_base_power` não tem
    hoje. 1 carta, registrado como gap residual.
  - Workflow completo: baseline via `git show HEAD:...`, `PERDEU=0` (7 cartas
    mudaram, todas ganho de cobertura — eram blocos sem nenhum efeito antes),
    `gerar_dbs.py`, `snapshot_parser.py`, `smoke_test.py` 100%,
    `smoke_test_broad.py` 40/40, e 4 cenários manuais diretos (opp_leader,
    own_leader, selected com escolha do melhor candidato do oponente, e sem
    candidato não quebra nem aplica nada).
- `TODO.md` e `comparacao_simulador_vs_IA.md` atualizados (médios: 6 → 5).

**Estado atual:**
- Pendente de commit: `simular_deck_usuario.py`, `TODO.md`,
  `comparacao_simulador_vs_IA.md`, `scriptis_da_ia/gerar_effects_db.py`,
  `scriptis_da_ia/optcg_engine/decision_engine.py`,
  `scriptis_da_ia/card_effects_db.json`,
  `scriptis_da_ia/card_analysis_db.json`,
  `scriptis_da_ia/parser_snapshot.json`.

**Próximo:**
- Commitar/push o que está pendente acima.
- **3. Auditoria via replay/partida real instrumentada** — ainda não
  iniciada (era o 3º item do plano do usuário, "vamos fazer 1, depois 2 e
  depois 3"). Rodar `replay_optcg.py` com partidas reais e procurar
  comportamento estranho na prática, em vez de seguir só a lista teórica
  de gaps.
- 5 "médios" restantes sem urgência (PeekLife, TrashAllFaceUpLife,
  ForceOpponent, QueueUpEndOfTurnAction/OppMainPhase, FieldCantAttackLeader).
- Sistema de imunidade — dívida consciente, fora de escopo.

---

## 2026-06-29 00:15 — Claude

**Feito** (sessão tinha travado/fechado o app no meio do bloco anterior;
usuário voltou, confirmei que nada se perdeu no disco, commitei e dei push
do bloco pendente, depois segui com o item que tinha ficado como chip de
background):
- Push do commit `4ea805f` (Freeze + SaveTargetName + investigação CantPlay*,
  ver bloco anterior) — `a5b3007..4ea805f main -> main`, hook de pre-push
  passou normal.
- **Corrigido o `target='own_character'` não tratado em `buff_power`**
  (achado de brinde na rodada anterior, virou chip — usuário pediu pra
  investigar agora em vez de background). 15 cartas reais usam esse target
  (EB04-009, OP03-039, OP08-018, OP08-019 x2, OP08-095, OP08-103, OP10-092,
  OP12-001, OP12-016, OP12-018, OP12-019, OP13-022, P-011, ST13-001) e
  TODAS caíam no fallback sem aplicar nada (no-op silencioso desde sempre,
  não é regressão de hoje). Implementado: seleciona entre `me.field_chars`
  via `eligible_cards`/`choose_highest_board_value` (sem filtro de tipo,
  distinto do `select_filtered` da rodada anterior). No caminho, achei que
  o PARSER também não capturava os filtros do texto em 3 dessas cartas
  ("with N power or less" → `power_lte`, "other than [Nome]" → `exclude`:
  OP10-092, OP12-001, OP13-022) — corrigido junto.
- Workflow completo: baseline via `git show HEAD:...`, `PERDEU=0` (3 cartas
  mudaram no parser, as com filtro — as outras 12 sem filtro não mudam
  estrutura), `gerar_dbs.py`, `snapshot_parser.py`, `smoke_test.py` 100%,
  `smoke_test_broad.py` 40/40, e 3 cenários manuais diretos (sem filtro
  escolhe o mais forte, com `power_lte` filtra certo, com `exclude` ignora
  a carta excluída mesmo sendo a melhor candidata).
- `TODO.md` atualizado com o achado/correção como item separado.

**Estado atual:**
- Pendente de commit: `TODO.md`, `scriptis_da_ia/gerar_effects_db.py`,
  `scriptis_da_ia/optcg_engine/decision_engine.py`,
  `scriptis_da_ia/card_effects_db.json`,
  `scriptis_da_ia/card_analysis_db.json`,
  `scriptis_da_ia/parser_snapshot.json`.

**Próximo:**
- Commitar e (se usuário pedir) dar push do que está pendente acima.
- 6 "médios" sem urgência (ver `comparacao_simulador_vs_IA.md`).
- `simular_deck_usuario.py` com import quebrado pré-existente, ainda não
  corrigido.
- Sistema de imunidade (família inteira ausente) — dívida consciente, fora
  de escopo.

---

## 2026-06-28 23:50 — Claude

**Feito ("vamos fazer o restante" — os 3 gaps reais que sobraram):**
- **Freeze (don/stage/card) implementado de verdade.** Campo novo
  `frozen_next_refresh` (bool) na classe `Card` (incluído também no
  `__deepcopy__` customizado — lista hardcoded, fácil esquecer) e
  `frozen_don_count` (int) em `GameState`. `refresh_phase` agora pula o
  untap de characters/stage congelados (e o flag é consumido, só vale 1
  refresh) e segura `min(frozen_don_count, don_rested)` DON sem desvirar.
  Handlers de `lock_opp_character_refresh` (18 cartas, filtro
  cost_lte/cost_eq), `lock_opp_don_refresh` (1 carta) e
  `lock_self_character_refresh` target='this_card' (1 carta, OP04-090)
  implementados de verdade (antes só retornavam "não implementado").
  Testado manualmente com script direto (character/stage/DON congelados
  ficam rested 1 refresh e voltam ao normal na seguinte) + smoke tests.
- **CantPlayAnyCardsFromHand/CantPlayAnyCharactersToField no oponente:
  investigado e descartado.** Busquei "opponent cannot play" em todas as
  variantes no `cards_rows.csv` — 0 cartas reais. As 18 cartas com "cannot
  play" no banco são TODAS auto-aplicadas (custo de ramp de DON, já
  cobertas por `self_cant_play`). O exemplo "Imu" do doc original não
  corresponde a carta real do nosso pool — não implementei código
  especulativo sem carta pra validar (mesma lógica de não deixar código
  morto). Perguntei ao usuário antes de pular, ele confirmou.
- **SaveTargetName / memória de alvo entre steps implementado.** Isso
  cresceu de escopo no meio do caminho (avisei o usuário, ele confirmou
  seguir): além da memória em si, precisei consertar DOIS bugs
  pré-existentes que travavam as cartas-alvo:
  1. `parse_power_buff` (`gerar_effects_db.py`) tinha um bug de bracket:
     "select up to N of your [Tipo]..." com `[...]` colchetes nunca batia
     porque a regex só previa `{...}` chaves (cartas reais usam os 2
     estilos + `"..."` aspas, inconsistente na fonte). Generalizado pra
     cobrir os 3 estilos.
  2. Ordem de despacho dos sub-parsers dentro de `parse_block` NÃO segue a
     ordem do texto original — `select_grant_unblockable_turn`/
     `lock_self_character_refresh` (consome o alvo) era despachado ANTES
     de `buff_power` (que seleciona o alvo), deixando a memória vazia no
     momento errado. Corrigido com `steps.sort()` estável no final de
     `parse_block` (quem tem `target='selected'` sempre vai depois).
  - Mecanismo: `EffectExecutor._last_selected`, zerado a cada `execute()`,
    preenchido por `buff_power` com `target='select_filtered'` (nova opção,
    seleciona entre `field_chars`+`leader` por `card_matches_filter`,
    escolhe o melhor por `choose_highest_board_value`), consumido por
    `select_grant_unblockable_turn`/`lock_self_character_refresh` com
    `target='selected'` (se não há memória, não aplica em ninguém — mais
    seguro que adivinhar).
  - Resolveu de verdade: OP07-057, OP12-077 (residuais de
    `OppNoBlockerThisTurn`) e EB02-021 (residual de Freeze, "the selected
    Character will not become active"). OP12-016 (Rayleigh) fica de fora —
    o alvo dele vem de um CUSTO ("give 2 DON to 1 of your Rayleigh"), não
    de um step anterior; memória custo→efeito é mecanismo diferente, não
    implementado (1 carta, raro).
  - **Achado de brinde**: ao generalizar a regex de `parse_power_buff`,
    descobri que o padrão "up to N of your [Tipo] cards gains +X power"
    (SEM a palavra "select") já existia em 48 cartas no banco e SEMPRE
    caía em `target='self'` por engano (bug pré-existente — o efeito não é
    "esta carta ganha power", é "escolha 1 personagem do tipo X no
    campo"). Corrigido para `target='select_filtered'` nas 48. Validei uma
    amostra manualmente (OP03-117, OP04-093, OP11-007 — este último tinha
    um false-positive extra: pegava "leader" de uma cláusula de condição
    não relacionada, "if your leader has the Navy type, up to 1 of your
    Navy type Characters gains...") — todas as 48 são correções reais, não
    regressão.
  - **Achado de brinde #2, NÃO corrigido** (fora de escopo, registrado):
    `target='own_character'` também é gerado pelo parser de `buff_power`
    mas o engine nunca trata esse valor — cai no fallback sem aplicar nada
    (no-op silencioso). Criei um chip de task em background pra investigar
    quantas cartas reais isso afeta e corrigir — não toquei agora pra não
    inflar mais o escopo desta sessão.
- Workflow seguido corretamente: baseline limpo via
  `git show HEAD:scriptis_da_ia/parser_snapshot.json` (não `git stash`,
  lição da sessão anterior) → editei parser → `PERDEU=0` em todas as 3
  rodadas (Freeze não mudou parser; SaveTargetName mudou 52 cartas, todas
  conferidas) → `gerar_dbs.py` → `snapshot_parser.py` → `smoke_test.py`
  100% → `smoke_test_broad.py` 40/40 (rodado 3x, uma por feature).
- `TODO.md` e `comparacao_simulador_vs_IA.md` reescritos: zero gaps "reais"
  restantes, só os 6 "médios" sem urgência (PeekLife, TrashAllFaceUpLife,
  MatchLeaderToBasePower, ForceOpponent, QueueUpEndOfTurnAction/
  OppMainPhase, FieldCantAttackLeader).

**Estado atual:**
- Tudo no disco, NÃO commitado ainda (a sessão travou antes do commit).
  `git status`: `TODO.md`, `comparacao_simulador_vs_IA.md`,
  `scriptis_da_ia/card_analysis_db.json`, `scriptis_da_ia/card_effects_db.json`,
  `scriptis_da_ia/gerar_effects_db.py`,
  `scriptis_da_ia/optcg_engine/decision_engine.py`,
  `scriptis_da_ia/parser_snapshot.json`. Próxima ação: revisar `git diff`
  uma vez e commitar (1 commit ou 3 separados por feature — a decidir).

**Próximo:**
- Commitar o que está pendente (ver acima).
- Task em background pendente: `target='own_character'` não tratado em
  `buff_power` (chip criado, não iniciado).
- 6 "médios" sem urgência (ver `comparacao_simulador_vs_IA.md`).
- `simular_deck_usuario.py` com import quebrado pré-existente, ainda não
  corrigido (fora de escopo, mencionado em sessões anteriores).

---

## 2026-06-28 22:30 — Claude

**Feito:**
- Implementado `OppNoBlockerThisTurn`, com correção de rumo no meio do
  caminho (registrando aqui pra próxima sessão não repetir o erro):
  1ª tentativa: classifiquei como "gap real total" — errado, a action
  `lock_opp_blocker_turn` já existia no engine. 2ª tentativa: levantei 6
  cartas "ausentes" e categorizei 3 delas (OP07-057, OP12-016, OP12-077)
  como precisando de mecanismo novo de "atacante específico" — também
  impreciso: 2 dessas (na real, eram outras: OP13-057/ST01-016, não essas 3)
  já eram cobertas por `select_grant_unblockable_turn`. Só depois de varrer
  as 20 cartas reais do banco com "cannot activate Blocker" uma a uma contra
  `card_effects_db.json` é que cheguei no número certo: 17/20 já cobertas,
  3 residuais (OP07-057, OP12-016, OP12-077) que precisam de "lembrar alvo
  selecionado num step anterior" — mesma raiz do gap `SaveTargetName`, não
  implementado agora (registrado como item ligado, não isolado).
  - Implementado: extensão de regex em `gerar_effects_db.py`
    (`parse_lock_attack`, novo bloco `m_block_filtered`) cobrindo "All" (em
    vez de "up to N") e cláusula de custo/power no meio da frase. 3 cartas
    a mais: OP11-013, OP12-051, ST21-016.
- **Achado importante no caminho**: ao validar com `diff_parser.py`, descobri
  que 9 cartas MUDARAM sem eu ter tocado nelas — investigação revelou que o
  commit `4f41178` ("Implementa buffs dinamicos do ActV3", de sessão
  anterior) já tinha implementado `buff_power_per_count` no parser, mas
  NUNCA regenerou/commitou um `parser_snapshot.json` atualizado — violação
  do workflow documentado no `TODO.md` ("PERDEU=0" devia ter sido confirmado
  e não foi). Validei manualmente que a implementação está correta (ex:
  "+1000 power for every 3 rested DON" → `count_per=3, source='rested_don'`,
  bate exato) e completei o workflow que faltava: `gerar_dbs.py` +
  `snapshot_parser.py`.
- **Workflow seguido corretamente nesta sessão** (depois de um tropeço meu —
  rodei `snapshot_parser.py` DEPOIS de editar o parser por engano na 1ª
  tentativa, o que invalidaria a comparação; corrigido buscando o snapshot
  real via `git show HEAD:...` em vez de `git stash`, que reintroduziu o
  erro numa segunda tentativa antes de eu perceber e fazer do jeito limpo):
  `gerar_effects_db.py` editado → `gerar_dbs.py` (regenera
  `card_effects_db.json` + `card_analysis_db.json`) → `snapshot_parser.py`
  → diff contra baseline real do HEAD → `PERDEU=0`, 12 `MUDOU` (3 minhas + 9
  do achado do `4f41178`) → `smoke_test.py` (100%) → `smoke_test_broad.py`
  (40/40 partidas sem exceção).
- Documentação corrigida de novo (3ª revisão do dia neste tópico):
  `comparacao_simulador_vs_IA.md` e `TODO.md` atualizados com a contagem
  final (44 cobertos / 23 ausentes) e os 2 itens implementados marcados.

**Estado atual:**
- Pronto pra commit: `gerar_effects_db.py`, `card_effects_db.json`,
  `card_analysis_db.json`, `parser_snapshot.json`, `comparacao_simulador_vs_IA.md`,
  `TODO.md`.

**Próximo:**
- Gaps reais restantes (2 genuínos + 1 ligado): `Freeze` funcional (refresh
  phase), `CantPlayAnyCardsFromHand`/`CantPlayAnyCharactersToField` no
  oponente, e o conjunto `SaveTargetName`/3 cartas residuais de
  `OppNoBlockerThisTurn` (memória de alvo entre steps — maior escopo,
  resolver junto).
- 7 "médios" sem urgência.
- `simular_deck_usuario.py` com import quebrado pré-existente, ainda não
  corrigido.
- **Lição pra próxima sessão**: sempre que `diff_parser.py` mostrar mudanças
  que você não fez, INVESTIGAR antes de assumir bug seu — pode ser trabalho
  de sessão anterior sem snapshot regenerado (foi o caso aqui).

---

## 2026-06-28 21:15 — Claude

**Feito:**
- Revisão completa (não amostragem) dos 15 itens de
  `comparacao_simulador_vs_IA.md` ("8 relevantes" + "7 médios") direto contra
  `decision_engine.py`, com linha de código citada para cada um. Resultado:
  - Dos 8 "relevantes": `DealDamage`/`TakeDamage`, `ShuffleHandIntoDeck` e
    `CycleEntireHandToDeckBottom` já estavam implementados. `BuffSelf1KPerXTargets`/
    `BuffXPerGivenDon`/`BuffXPerTopDeckCost` é parcial (framework
    `buff_power_per_count` existe, falta só 2 fontes novas — barato). Restam 4
    gaps reais: `OppNoBlockerThisTurn`, `Freeze` (stub confirmado por
    comentário no próprio código, linha 1722), `CantPlayAnyCardsFromHand`/
    `CantPlayAnyCharactersToField` direcionado ao OPONENTE (hoje só
    auto-aplicado via `self_cant_play`).
  - Dos 7 "médios": **todos os 7 confirmados ausentes** — a categorização
    original estava invertida (a lista de "menor prioridade" é a que está
    100% sem cobertura). Confirmado especificamente que `set_base_power` só
    aceita valor fixo (não serve para `MatchLeaderToBasePower`, que precisa
    copiar dinamicamente) e que `cannot_attack_self` é mecanismo diferente de
    `FieldCantAttackLeader`.
- Reescrita a seção "BURACOS" de `comparacao_simulador_vs_IA.md` com a tabela
  corrigida, status verificado por código, e contagem nova (42 cobertos / 25
  ausentes, era 39/28).
- Reescrita a seção "BURACOS DE MECÂNICA" de `TODO.md` com a lista real
  (4 gaps + 1 parcial barato + 7 médios todos ausentes), marcando os 3 itens
  já implementados como `[x]`.

**Estado atual:**
- Edições prontas pra commit em `comparacao_simulador_vs_IA.md` e `TODO.md`.

**Próximo:**
- Implementar os gaps reais confirmados, em ordem de impacto sugerida:
  1. `OppNoBlockerThisTurn` (maior impacto competitivo, habilita lethal)
  2. `CantPlayAnyCardsFromHand`/`CantPlayAnyCharactersToField` no oponente
     (arquétipo control, ex: Imu)
  3. `Freeze` funcional (precisa tocar `refresh_phase`)
  4. (barato) acrescentar fontes `don_attached`/`top_deck_cost` no
     `buff_power_per_count`
- `simular_deck_usuario.py` com import quebrado pré-existente, ainda não
  corrigido (achado em bloco anterior).

---

## 2026-06-28 20:50 — Claude

**Feito:**
- Verificação pedida pelo usuário: conferi se o `origin/main` no GitHub está
  de fato espelhando a higienização toda feita hoje (não só local). Resultado:
  `git status` limpo, local e remoto no mesmo commit (`git rev-list
  --left-right --count origin/main...HEAD` = `0 0`). Confirmado via
  `git ls-tree -r origin/main` que os 14 arquivos removidos hoje estão
  realmente ausentes do remoto, os novos (`CLAUDE.md`, `HANDOFF.md`,
  `scripts/hooks/pre-push`, `_referencias/.../decompiled_python/*`) estão
  presentes, e a DLL/PDFs/dnspy-export continuam fora do git (0 matches).
- **Achado extra**: 2 arquivos `.pyc` (`scriptis_da_ia/optcg_engine/
  __pycache__/engine.cpython-313.pyc` e `simulator.cpython-313.pyc`) estavam
  RASTREADOS no git apesar de `__pycache__/` estar no `.gitignore` — devem
  ter sido adicionados antes da regra existir. Os nomes ("engine", "simulator")
  não correspondem a nenhum `.py` que existe hoje no repo (são bytecode de
  arquivos-fonte já renomeados/removidos há muito tempo). Removidos do git
  com `git rm --cached` (continuam no disco local como cache normal, só não
  versionados mais).

**Estado atual:**
- `git rm --cached` executado, pronto pra commit. Repo tem 87 arquivos
  rastreados no remoto depois da higienização de hoje (era mais antes).

**Próximo:**
- Mesma pendência de antes: corrigir `comparacao_simulador_vs_IA.md` e a
  seção de buracos do `TODO.md` com a lista real de gaps (~3, não 8).
- Implementar os ~3 gaps reais confirmados quando a doc for corrigida.
- `simular_deck_usuario.py` com import quebrado pré-existente (achado às
  20:35), ainda não corrigido.

---

## 2026-06-28 20:35 — Claude

**Feito:**
- Decisão tomada sobre o destino de `optcg_engine/models.py` + companhia
  (`action_system.py`, `validators.py`, `card_power.py`, `card_queries.py`,
  `card_loader.py`, `enums.py`): usuário escolheu **mover para referência**,
  não deletar nem integrar. Executado:
  - `git mv` dos 7 arquivos para
    `_referencias/simulador-oficial/decompiled_python/` (nome com
    UNDERSCORE, não hífen — hífen quebraria import de pacote Python).
  - Criado `decompiled_python/__init__.py` documentando o que é e por que
    está lá.
  - `scriptis_da_ia/optcg_engine/__init__.py` foi ESVAZIADO — antes
    importava todo esse material automaticamente em TODO import do pacote
    (ou seja, rodava em toda chamada da API mesmo sem ser usado). Agora só
    tem docstring + `__version__`. Confirmado por grep: nada em
    `scriptis_da_ia/` faz `from optcg_engine import X` no nível do pacote
    (sempre `from optcg_engine.decision_engine import X` etc), então é
    seguro.
  - Validado: `from decompiled_python.models import ...` etc funciona
    isolado (pacote próprio, imports relativos internos intactos). E
    `import optcg_engine`, `decision_engine.py`, `api.py`, `replay_optcg.py`,
    `simulation_worker.py` continuam importando OK depois da mudança —
    inclusive o `smoke_test.py` (testes de regressão do motor) passou 100%.
  - Atualizados `scriptis_da_ia/README.md` e `CLAUDE.md` pra refletir a nova
    localização e não apontar mais pro `MAPA_EFEITOS.md` (já removido).
- **Achado colateral (NÃO corrigido ainda)**: `scriptis_da_ia/
  simular_deck_usuario.py` tem um import quebrado pré-existente — importa
  `parse_card_effects` de `decision_engine.py`, mas essa função não existe
  lá (só existe `parse_card_effects_basic`). Confirmado via `git show` que
  o bug já existia no commit `9237f2c` (antes desta sessão), não foi
  introduzido pela movimentação de hoje. Script provavelmente não é
  executado há um tempo. Não corrigi — fora do escopo desta tarefa.

**Estado atual:**
- Tudo pronto pra commit: 7 `git mv`, 1 arquivo novo (`__init__.py` da
  pasta de referência), edições em `optcg_engine/__init__.py`,
  `scriptis_da_ia/README.md`, `CLAUDE.md`.

**Próximo:**
- Corrigir `simular_deck_usuario.py` (import quebrado, achado acima) se for
  usar esse script.
- Mesma pendência de antes: corrigir `comparacao_simulador_vs_IA.md` e a
  seção de buracos do `TODO.md` com a lista real de gaps (~3, não 8).
- Implementar os ~3 gaps reais confirmados (`OppNoBlockerThisTurn`, `Freeze`
  funcional, `CantPlay*` direcionado ao oponente) quando a doc for corrigida.

---

## 2026-06-28 20:10 — Claude

**Feito:**
- Higienização round 2, a pedido do usuário: conferidos TODOS os `.md` e
  `.json` do repo (fora node_modules/.next/.git). Achados e tratados:
  - `public/modelo_optcg.json` — gêmeo do `src/data/modelo_optcg.json` já
    removido na limpeza anterior; também não usado em lugar nenhum. Removido.
  - `scriptis_da_ia/MAPA_EFEITOS.md` — **removido por estar desatualizado e
    enganoso**: afirmava que `activate_main` (253 cartas) e `passive` (408
    cartas) "NÃO EXECUTADOS pelo engine", o que é FALSO hoje — conferi no
    código (`_activate_main_effects` em `decision_engine.py:4472`, lógica de
    `passive` em várias linhas) e ambos estão implementados há tempo. Quem
    lesse esse arquivo hoje seria induzido a pensar que falta implementar
    algo que já existe. `TODO.md` já cumpre o papel de tracking atualizado.
  - `scriptis_da_ia/PLANO_UNIFICACAO.md` — mantido (tem valor histórico real:
    documenta o diagnóstico e a decisão "replay vira só visualização"), mas
    adicionei nota `STATUS: CONCLUÍDO` no topo, já que o plano que ele
    descreve está executado (confirmado na auditoria de 19:55 desta sessão)
    e o texto original não deixava isso claro pra quem lesse depois.
  - Conferidos e OK, sem mudança: `TODO.md`, `RESUMA_SESSAO.md`, `README.md`,
    `scriptis_da_ia/README.md`, `_referencias/simulador-oficial/notas.md`,
    `comparacao_simulador_vs_IA.md` (já sabíamos que tem gaps errados, ainda
    não corrigido — ver bloco anterior), `card_analysis_db.json`,
    `card_effects_db.json`, `parser_snapshot.json`, `censo_padroes.json`,
    `propostas_finais_209.json`, configs (`package.json`, `tsconfig.json`,
    `vercel.json`, `.claude/settings.local.json`).
- Validar antes do próximo commit: `npx tsc --noEmit` + `npx eslint` (não
  deveriam ser afetados, já que `public/` não entra no build do Next; e
  `.md` não afeta lint/build).

**Estado atual:**
- `git rm` já executado para os 2 arquivos fantasma; edição de
  `PLANO_UNIFICACAO.md` feita. Pronto para commit.

**Próximo:**
- Mesma pendência do bloco anterior: corrigir `comparacao_simulador_vs_IA.md`
  e a seção de buracos do `TODO.md` com a lista real de gaps (~3, não 8).
- Decidir destino final de `optcg_engine/models.py` + companhia (pausado
  pela higienização, ver bloco de 19:55).

---

## 2026-06-28 19:55 — Claude

**Feito:**
- Auditoria "dois motores" (`decision_engine.py` vs `optcg_engine/models.py` +
  `action_system.py`/`validators.py`/`card_power.py`/`card_queries.py`,
  decompilados da DLL oficial): confirmado que NÃO há acoplamento entre eles
  hoje (zero imports cruzados) e que `decision_engine.py` (o motor real de
  produção) já está correto e fiel à DLL nos pontos de maior risco testados
  por amostragem (cálculo de poder, resolução de combate, economia de DON,
  direção do deck topo/fundo). Detalhe completo na resposta da sessão; não
  escrevi isso num .md ainda — se for re-auditar, repetir a amostragem.
- **Achado importante**: `comparacao_simulador_vs_IA.md` (de sessão anterior)
  **superestimou os gaps de cobertura**. Buscou só por nome literal no C#,
  sem checar sinônimos funcionais no Python. Pelo menos 4 dos "8 efeitos
  relevantes ausentes" já existem sob outro nome (`deal_damage`,
  `ShuffleHandIntoDeck`/`CycleEntireHandToDeckBottom` já cobertos). Gaps reais
  confirmados ficam em ~3: `OppNoBlockerThisTurn` (ausente), `Freeze`/
  `bSkipNextActive` (nome existe mas é stub não funcional), `CantPlay*`
  direcionado ao oponente (só funciona auto-aplicado hoje, ex: carta Imu).
  **`comparacao_simulador_vs_IA.md` e a seção de buracos do `TODO.md` ainda
  NÃO foram corrigidos com essa informação** — próxima sessão deveria
  atualizar antes de implementar qualquer um dos gaps.
- **Higienização de arquivos fantasma** (a pedido do usuário, antes de decidir
  o que fazer com os "dois motores"). Removidos (git rm, commitado):
  - `src/utils/deck-analyzer.ts` — um TERCEIRO motor morto: reimplementação
    própria em TypeScript da análise de deck, nunca importada por nenhuma
    página do front (a API Python já faz esse trabalho). `buildAnalysisIndex`
    era exportada mas nunca chamada.
  - `src/data/card_analysis_db.json` (2.8 MB) e `src/data/modelo_optcg.json`
    (56 KB) — só existiam por causa do módulo morto acima.
  - `scriptis_da_ia/check_leader.py`, `check_meta_count.py` — scripts de
    debug de uso único, hardcoded, sem reuso.
  - `scriptis_da_ia/test_payload.json` — sem nenhuma referência no repo.
  - `scriptis_da_ia/Proficfile` — vazio (0 bytes), nome com typo
    (provavelmente devia ser `Procfile`); não usado (Railway usa start
    command configurado no painel, não Procfile).
  - `scriptis_da_ia/modelo_optcg.json`, `.pkl`, `features.csv`,
    `resultados_simulacao.csv` — artefatos gerados pela abordagem de ML já
    documentada como superada em `scriptis_da_ia/README.md` (os SCRIPTS
    `treinar_modelo.py` e `coletar_dados_optcg.py` foram MANTIDOS — o
    README registra valor futuro possível pro coletor).
  - Validado: `npx tsc --noEmit`, `npx eslint` (0 erros) e import do
    `decision_engine.py`/`api.py` em Python continuam OK após a remoção.
  - **NÃO removidos** (têm uso real ou são trabalho pendente documentado):
    `propostas_completo.py`/`propostas_finais_209.json`/`censo_padroes.py`/
    `censo_padroes.json` (insumo dos lotes 9-11 do parser, ainda não
    aplicados — ver `RESUMA_SESSAO.md`), `smoke_test*.py`, `snapshot_parser.py`,
    `diff_parser.py`, `gerar_dbs.py` (ferramentas ativas do workflow).
  - `scriptis_da_ia/card_analysis_db.json` (no scriptis_da_ia, NÃO no
    src/data) é a base REAL usada pela API — não tocar nesse.

**Estado atual:**
- Mudanças prontas para commit (limpeza de arquivos fantasma). Ainda não
  commitado no momento em que este bloco foi escrito — ver `git status`.

**Próximo:**
- Corrigir `comparacao_simulador_vs_IA.md` e `TODO.md` com a lista real de
  gaps (~3, não 8) antes de implementar qualquer um deles.
- Decidir o destino final de `optcg_engine/models.py` + companhia (4470
  linhas decompiladas, fiéis à DLL, sem uso em produção): a recomendação
  anterior foi mantê-los como referência congelada (não merge de modelo de
  dados, que seria reescrita de alto risco contradizendo a conclusão já
  documentada de que a arquitetura atual está correta) — usuário ainda não
  confirmou essa direção, decisão pausada pela higienização.
- Implementar os ~3 gaps reais confirmados (`OppNoBlockerThisTurn`, `Freeze`
  funcional, `CantPlay*` direcionado ao oponente) quando a documentação for
  corrigida.

---

## 2026-06-28 19:10 — Claude

**Feito:**
- Criados `CLAUDE.md` (lido automaticamente pelo Claude Code no início de
  toda sessão nesta pasta) e este `HANDOFF.md`, para o projeto não depender
  de memória de sessão nem de "lembrar de avisar" a próxima IA.
- Criado hook de `pre-push` (`scripts/hooks/pre-push` + instalador
  `scripts/setup-git-hooks.sh`): bloqueia `git push` se `HANDOFF.md` não
  tiver sido alterado nos commits enviados. `.git/hooks/` não é versionado
  pelo git — **cada clone/máquina nova precisa rodar
  `sh scripts/setup-git-hooks.sh` uma vez** para o hook funcionar lá também.
  Testado: tentei dar push sem atualizar este arquivo e foi bloqueado
  corretamente.
- Commits feitos e enviados ao `origin/main`: correção do `UnboundLocalError`
  do `eligible_cards`, zeragem dos erros de lint/build do front, e agora os
  arquivos de continuidade + o hook.

**Estado atual:**
- Tudo commitado. `git push` deve passar agora que este bloco foi escrito.

**Próximo:**
- Continuar o trabalho de engine/parser que estava em andamento antes
  (ver seção "🔴 PROBLEMAS ABERTOS" e "🔴 BURACOS DE MECÂNICA" do `TODO.md`):
  `_choose_to_trash` não avalia qualidade do trash, Five Elders (c10) nunca
  jogada, e os buracos de mecânica priorizados (DealDamage, Freeze, etc.).
- Se trabalhar em outra máquina/clone, lembrar de rodar
  `sh scripts/setup-git-hooks.sh` primeiro.

---

## 2026-06-28 18:45 — Claude

**Feito:**
- Confirmado: a migração para "um motor só" está correta — o replay
  (`scriptis_da_ia/.../replay` ou similar) só delega para `OPTCGMatch`
  (`_place_start_stage`, `refresh_phase`, `main_phase`), sem regra duplicada.
- Corrigido bug real em `scriptis_da_ia/optcg_engine/decision_engine.py`:
  `_execute_step` (linha ~1318) chamava `eligible_cards` (linha ~2528) antes
  de qualquer import local da função ter sido executado nesse branch
  específico → `UnboundLocalError: cannot access local variable
  'eligible_cards'`. Corrigido movendo `from optcg_engine.rules_facade import
  eligible_cards` para o topo da função (linha ~1319), em vez de depender dos
  imports locais espalhados em cada branch.
- Zerados os 23 erros de lint do frontend (`npx eslint`), em 8 arquivos:
  `src/app/analysis/page.tsx`, `src/app/api/sync-cards/route.ts`,
  `src/app/cards/page.tsx`, `src/app/deck/page.tsx`,
  `src/app/meus-decks/page.tsx`, `src/app/page.tsx`,
  `src/app/simulate/page.tsx`, `src/utils/deck-analyzer.ts`.
  Principais correções: troquei `any` por tipos concretos (`ApiCard`,
  `AnaliseResult`, `SavedDeck`, `CardThumb`), `prefer-const`, ordem de
  declaração de função antes do `useEffect` (`react-hooks/immutability`),
  componente criado durante render (`CostChart` → `renderCostChart()` em
  `deck/page.tsx`), aspas não escapadas em JSX, e `setState` síncrono dentro
  de efeitos (`react-hooks/set-state-in-effect`) resolvido com
  `queueMicrotask(() => { ... })` — mesmo padrão que já existia em
  `simulate/page.tsx`.
- Corrigido bug de build do Next.js (pré-existente, não causado por mim):
  `useSearchParams()` sem `<Suspense>` quebrava `next build` em `/analysis`,
  `/deck` e `/simulate`. Cada página foi dividida em
  `export default function XPage() { return <Suspense><XPageContent /></Suspense> }`
  + `function XPageContent() { ... lógica original ... }`.
- Validado: `npx eslint` → 0 erros (só warnings antigos de `<img>`/deps
  pré-existentes), `npx tsc --noEmit` → limpo, `npx next build` → compila e
  gera as 14 rotas com sucesso.
- Conferido cálculo de DON do usuário no turno 11 do replay (3 custo do
  Empty Throne + 5 anexados no Marcus Mars + 2 anexados no Imu = 10, não 11
  — engine está certo, foi erro de conta do usuário).

**Estado atual:**
- Mudanças ainda NÃO commitadas (ver `git status` / `git diff --stat`).
  Arquivos modificados: `scriptis_da_ia/optcg_engine/decision_engine.py`,
  `src/app/analysis/page.tsx`, `src/app/api/sync-cards/route.ts`,
  `src/app/cards/page.tsx`, `src/app/deck/page.tsx`,
  `src/app/meus-decks/page.tsx`, `src/app/page.tsx`,
  `src/app/simulate/page.tsx`, `src/utils/deck-analyzer.ts`.

**Próximo:**
- Decidir se commita essas correções antes de continuar com novas features.
- Continuar com o que estava em andamento antes do lint (mexer nas faixas /
  migração para motor único, conforme contexto da sessão anterior do Codex).
