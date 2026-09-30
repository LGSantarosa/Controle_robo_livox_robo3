# Diário de pesquisa — Controle_robo_livox (PIBIT)

> Uma entrada por sessão de trabalho: o que foi tentado, o que funcionou,
> o que falhou E POR QUÊ. Fracasso documentado é resultado — vai pro artigo.
> Decisões formais têm registro próprio em `docs/decisoes/`.

## 2026-09-30 (dev, robô e lidar DESLIGADOS) — REPOSITÓRIO SÓ DO ROBÔ 3; R1 DISPENSADO, R2 REVERTIDO COM TESTE

O robô 3 passou a viver em `Controle_robo_livox_robo3` (cópia de `d54d05a`, a
ponta da `etapa6-pilha-robo3`). Decisão do dono: aqui não se protege mais o
robô 2. Os dois bloqueadores da revisão da 063 foram tratados antes de qualquer
corrida, cada um num commit.

- **R1 dispensado** (`e2b9c62`, só documentação): o conserto já escrito dava
  ao robô 3 o mesmo valor efetivo (2,0 s) e só servia para o robô 2. Foi
  descartado sem commit, preservado em `~/sessao-robo3/r1-robo3.patch`.
  Terminologia exigida na revisão: **dispensado, defeito ainda existente para
  `robo:=2`** — não "corrigido".
- **R2 revertido com teste**: o teste dos dois abortos da ré no meio da manobra
  foi escrito primeiro e reprovou só no caso "perdi a medida do /scan", como
  previsto. Depois da reversão, suíte **1847/0**.

### Tropeço de método: 13 falsas reprovações que eram minha shell

As duas primeiras rodadas da suíte deram **13 falhas** em
`tools/subidas_robo3`, com o wrapper parando na varredura de resíduo. A árvore
sem o diff passou inteira (1845/0) e a com diff, rodada de novo, também
(1847/0). Causa confirmada por reprodução: a varredura do `bin/subidas-robo3`
olha **todos os processos da máquina** e casa a palavra `ros2` em qualquer
linha de comando; a minha shell-pai continha `ros2 daemon stop` e ficou viva
durante o pytest. Com `echo ros2` no lugar, os mesmos 13 reprovam. **Regra
prática:** a suíte roda de uma shell cuja linha de comando não cite `ros2`, `gz`
nem `rviz2` — parar o daemon é um comando SEPARADO, antes.

Também: este clone novo não tinha `install/` e o shell do usuário carrega o
overlay do `Controle_robo_web`; a suíte só coleta depois de
`colcon build --base-paths ros2_packages --symlink-install` numa shell limpa
(`env -i`, só `/opt/ros/jazzy`): 6 pacotes, 28,5 s.

### Tarde: duas corridas, o web no lugar do RViz, e um launcher

**Corrida da 2ª leva (RViz).** Ida e volta limpas, zero nuvem velha do Livox.
Esta máquina aguenta o simulador e a de 29-09 não. O reflexo só cintilou, e o
gatilho não teve o que medir. Avaliação do dono: *"não emperrou, teve os stops e
soltou sozinho, isso tmb é vitória"*.

**Corrida pelo web.** A pilha subiu com `rviz:=false` e o `app.py` num venv novo.
O dono criou a rota no navegador, ida e volta. Na ombreira da porta, o STOP
sustentado virou escape em **1,71 s**, a primeira medida do critério da 063.
> 🔴 **ERRATA (30-09, mesma tarde):** não foi. Reconstruído do CSV, aquele
> gatilho disparou com 4,10 s sem progresso: o relógio corria desde o
> `APPROACH`, antes do STOP de onde medi. Ver a entrada "A dívida das rés".
Nas duas corridas apareceu o mesmo escape falso logo depois da meia-volta, e ele
ficou como achado aberto no `ESTADO_PROJETO.md`.

**Regra nova do dono:** o robô 3 sobe sempre pelo web. Daí o `bin/sobe-robo3-web`
(decisão 064).

### Fracasso útil: o teste achou três defeitos do launcher antes do Gazebo

O mais sério: com o console fechado, o wrapper **começava** o teardown, mandava
SIGINT aos grupos e morria de SIGPIPE na primeira escrita. O SHM e o registro
ficavam para trás. Apareceu porque um teste meu estourou o prazo e abandonou o
processo, e as sobras dele envenenaram as rodadas seguintes: dois `dorme.py`
vivos fizeram os outros testes recusarem por "marca de rodada". Lição dupla. O
harness de teste também precisa de teardown (fixture que reprova sobra). E
mutação feita por "primeira ocorrência" pode acertar o comentário do cabeçalho
e não o código: minha primeira mutação do `rviz:=false` "passou" por isso.

E a 1ª subida real morreu calada: o `calcos()` devolvia 1 sem calço, e isso
derrubava o `carrega_ros`. É o único ramo que os testes calçados não exercitam,
e era justamente o do uso real (064 §5, item 4).

SHM: nas duas sessões o teardown deixou órfãos (73 e 96 segmentos). Os dois
foram recuperados pela 061, e a recontagem deu zero. Na primeira sessão o
"antes" era um `ls -la`. Virou `shm_antes_reconstruido.tsv`, só com o conjunto
de nomes medido. Na segunda, o "antes" foi tirado de verdade antes de subir.

### Fim da tarde: a edição de rota do robô 1 chega ao web daqui

Pedido do dono: trazer as melhorias de usabilidade do web do robô 1. Estavam na
branch `arena-galpao` do `Controle_robo_web` (05 e 06-09), e não no `main` de
lá. Vieram por cherry-pick, um commit por vez, com a referência de origem:
arrastar ponto move o ponto (`8bd414c`), reordenar (`c0430b0`), apagar UM
ponto (`663232c`) e o conserto do teste (`0c1b583`). Três deles deram conflito,
porque o `map.js` daqui perdeu portas e trekking na demolição, e dois vinham
misturados com o `b934e29` (LED, "passagem", yaw ignorado na chegada), que o
dono não pediu. Resolvi à mão, ficando só a edição de rota. O yaw continua
definido pelo arraste. Ficaram de fora, por decisão: a luz ao concluir, a
pré-porta, o follow e `d2e9eec` ("o runner não desiste de ponto"), que é
política de navegação e não usabilidade.

Teste: o `test_ui_route_edit.py` roda a função real do `map.js` no `node`. A
mutação que tira a trava de rota-rodando reprova. `controle_web` 64/0.

🟡 **Falha intermitente sem identificação:** uma rodada da suíte deu 1871/1, e as
duas seguintes deram 1872/0. Eu não guardei o nome do teste (rodei sem `-rf`).
Suspeitos: os testes sensíveis a tempo, e os do launcher primeiro. Da próxima
vez, sempre `-rf`.

Teardown da sessão do launcher: o `confere` do SHM recusou por causa de UM
processo meu, uma shell cuja linha de comando citava padrões ROS no `grep`, e
não descende do wrapper. O launcher fez certo. Concluí à mão pela 061, com
recontagem zero.

### A 057 apareceu no teardown (sessão `20260930_150543-web`)

`collision_monitor` com **SIGSEGV depois do SIGINT**, destruindo a fonte
`livox` ("Destroying PointCloud" e, logo em seguida, a queda). É a 057
intermitente. A sessão rodava o `main` anterior ao conserto da dívida. O
launcher marcou código 1, como deve, e o SHM foi recuperado pela 061 (37 → 0).
Primeira ocorrência nas 5 sessões de hoje. Hardware continua bloqueado por ela
(061).

### A dívida das rés: por que o gatilho de 2 s nunca disparou

Pedido do dono depois do loop: *"tenta encontrar uma maneira de saber o pq ele
n está indo em 2s ... mas assim, cuidado, ele ta muito bom já"*.

Causa antes de solução. Eu tinha uma hipótese que não fechava com a medida da
manhã, então parei de argumentar com ela e reconstruí o relógio do progresso a
partir do CSV do seguidor: melhor distância, avanço mínimo de 0,05 m, e o
instante de cada entrada em `re`. **Os 15 gatilhos do loop: 4,10 s. O "1,71 s"
da manhã: 4,10 s também.** O gatilho rápido nunca disparou, e eu tinha escrito
que sim. Errata no ESTADO e na entrada da manhã.

O mecanismo estava no código: `res_seguidas` e `dist_antes_da_re` só zeram no
`__init__`. Chegando num objetivo, `dist_antes_da_re` encolhe até poucos
centímetros. Na perna seguinte, o primeiro escape (o falso, em campo aberto)
põe a dívida em 1, e ela só pagaria chegando mais perto daqueles centímetros,
agora do objetivo NOVO. Com a dívida, `teto_de_emperramento` devolve 4 s sem
nem olhar o mapa. Para não consertar às cegas, rodei a `mapa_ocupado` real
contra a `pista_obstaculos` nas duas poses dos STOPs: "parede", com raio de
0,6 e também de 0,4.

Conserto de duas linhas, no ramo do `cb_plano` que já separava missões
(`mesmo_objetivo`). Teste escrito antes, e reprovou nos dois pontos certos. A
proteção de 12-08 continua valendo dentro de cada objetivo (teste de replano
preservando). **Nada medido ainda:** o que se espera é um teto interno de 2 s
na porta, não 2,00 s exatos do STOP à manobra, porque o relógio pode ter
começado antes do STOP.

### O loop do dono, e o que ele mostrou

Rota `testedeerro`, 3 pontos, uma volta sem loop e duas com: 9/9 objetivos.
Os números estão no `ESTADO_PROJETO.md`. O que importa: o EMPERRADO falso
deixou de ser "logo depois da meia-volta" e apareceu em 8 de 9 pernas. E, na
porta 2, o gatilho que de manhã deu 1,71 s deu 5,48 e 5,05 s. Eu tinha uma
explicação pronta, que o escape falso rearma o teto de 4 s, e ela não fecha com
a medida da manhã, que também teve escape antes. Fica como hipótese, não como
causa. O primeiro teardown inteiramente automático do launcher saiu limpo.

### O desenho do robô no web passa a ser o robô 3

Queixa do dono: *"o 3 é estreito, ele está com o desenho do robô 1"*. O `map.js`
desenhava um quadrado fixo de 0,5 m centrado no `base_link`. O robô 3 tem
0,374 × 0,380 m e não é centrado: o `base_link` fica no eixo das motrizes, a
8 cm da frente, e o corpo vai 29 cm para trás. O quadrado punha metade do robô
à frente do eixo, onde não há robô.

O web passou a ler o polígono da `geometria_robo3.yaml` instalada, que é a mesma
fonte do Nav2 e do reflexo, cujo cabeçalho proíbe redigitar os vértices. O
polígono segue ao navegador na conexão (`robot_footprint`) e é desenhado como
é. O risco de direção vai do meio do corpo à frente, e um ponto marca o
`base_link`. Sem o arquivo, o desenho cai no quadrado antigo. Feito numa cópia
separada do repositório (worktree), com o loop do dono rodando no web: nada do
que ele via mudou até a próxima subida. Testes: 21 novos, e a função de desenho
roda no `node`. A mutação "sempre o quadrado" reprova.

## 2026-09-29, tarde (dev, robô e lidar DESLIGADOS) — O GATILHO DA RETOMADA, EM DUAS LEVAS: UMA CORRIDA E UM DEFEITO ACHADO NELA

Pedido do dono: fazer o robô 3 decidir mais rápido depois de ser parado pelo
`collision_monitor`, *"como o robô 1"*. Decisão formal: **063**.

### O que foi descoberto antes de escrever código

As manobras (ré, escape reto, pivô) já estavam no robô 3, herdadas inteiras. O
que faltava era a estratégia de DECISÃO em volta delas. E `re_parado_s = 4,0`
não podia simplesmente cair: os 4,0 s são a medida de 12-08 contra a
realimentação positiva da ré (ela dura 1,6–2,8 s e recua 0,30 m). A saída foi
separar *primeira decisão* de *rearme entre rés*, que eram o mesmo número.

Um candidato mais barato foi descartado por DADO: usar o gargalo do mapa
(`passagem_ativa`) como sinal. O CSV da corrida da manhã não tem uma única
amostra em modo `gargalo_*` — `passagem_estreita_habilitada` nasce `False`.
Sinal que não apareceu não vira gatilho.

### 1ª leva: corrida, e o número que reprovou metade dela

Corrida das 15:26, ida e volta pelo RViz, as duas com `Goal succeeded`. **RTF
medido em 0,99**: o "0,5x" de que o dono reclamou na manhã era carga da máquina,
não configuração — e o Livox simulado não foi tocado.

O resultado tem duas partes, e a maior delas **não é sobre retomada**:

- **13 das 15 paradas foram o Livox chegando atrasado** (>1 s, acima do
  `source_timeout`), não o reflexo. Mais 81 avisos de nuvem velha e 33 limpezas
  inteiras do costmap global. Avaliação do dono: *"meu pc n aguenta ficar
  simulando direito esse lidar"*. Limite de máquina, e nenhuma lógica de
  retomada conserta: o robô para porque o sensor parou.
- Na porta 2, as duas paradas que são do assunto: a 1ª liberou sozinha em
  4,34 s; a 2ª esperou **6,84 s** pela manobra. Contra 9,91 s da manhã,
  melhorou; contra os 2,0 s pretendidos, falhou.

### O defeito, e ele estava escrito no próprio log

*"EMPERRADO com frente livre (**4,38 m**)"*. O corredor à frente estava limpo
por quatro metros porque **quem segura o robô na porta é a ombreira AO LADO** —
e a sonda que eu tinha portado olhava só para a frente. O robô 1 sempre teve
dois portões (`obstacle_mapped` e `near_mapped`, este último com o comentário
*"ex. batente"*), e eu havia portado o fraco. Lá o raio do segundo foi de 0,35
para 0,6 m em 2026-06-28 pelo BO *"demorou ~15 s pra desencalhar do
conhecido"*: a mesma queixa, quatro meses antes.

**Fracasso útil, e a lição é geral:** em vão apertado, o que decide não está na
frente do robô — está do lado dele. Portar "a estratégia do robô 1" olhando um
gate só é portar metade e achar que acabou.

### 2ª leva: implementada e testada, NÃO corrida

`near_mapped` entrou (parede mapeada a <0,6 m, qualquer lado), e o aborto do
desencalhe deixou de zerar o relógio quando o que falhou foi a MEDIDA — perder
o `/scan` é soluço de sensor, não progresso, e cobrar 4 s por isso foi o que
custou 7,73 s na manhã. 18 testes novos, suíte **1845/0**, quatro mutações
conferidas.

> 🔴 **ERRATA (30-09):** a mudança do aborto por medida perdida **não estava
> coberta por nenhum dos 18 testes**, ao contrário do que o parágrafo acima dá a
> entender, e não tinha sido pedida pelo dono (achado R2 da revisão cruzada).
> Foi **revertida** em 30-09, com teste — ver a entrada daquele dia.

Ficou de fora, declarado como dívida: **o escalonamento para o giro** depois de
duas rés — o pedido literal do dono, e o `escalate_after` do robô 1. É o próximo
item. E o 0,6 m entrou como **herdado provisório** no perfil: aqui a
meia-diagonal do corpo é 0,314 (contra 0,25 no robô 1) e não há registro de AMCL
a compensar, então o número precisa ser medido, não adotado.

### Teardown, e um tropeço que vale registrar

O `SIGINT` no `ros2 launch` matou **só o pai**: os 22 filhos ficaram órfãos
vivos, Gazebo e RViz inclusive. Derrubados por PID, e só então zero processo,
`exit -2` no Gazebo e **nenhum SIGSEGV** (a dívida 057 não apareceu). Depois
disso a suíte reprovou 16 testes do wrapper `subidas-robo3` — e a causa **não**
era resíduo de SHM, como eu disse primeiro: era o **daemon do `ros2cli`** que as
minhas chamadas de pré-voo deixaram vivo, e que faz o wrapper recusar subir.
Parado o daemon, 18/18. Sobraram 32 segmentos de SHM sem a trava `_el`, que pela
regra da 061 §2.3.2 só se removem com inventário ANTES da corrida — inventário
que esta sessão não tirou.

---

## 2026-09-24 (dev, lidar desligado) — MÁQUINA E UNIDADE LIVOX DEIXAM DE SER UM PAR FIXO

Continuação offline da bancada registrada abaixo. O dono autorizou o item 1 e
apontou quatro restrições que mudaram a proposta inicial: `robo2`/`robo3`
misturariam computador e sensor; `.158` e `.169` têm MACs diferentes; o IP da
unidade não pode voltar como constante muda; e o host do perfil precisa existir
localmente antes de o setup fazer qualquer outra coisa.

O trabalho foi isolado na worktree/branch `livox-config-maquina-sensor`, sem
tocar `origin/etapa6-pilha-robo3` nem os artefatos do rebuild conduzido em
paralelo no diretório original.

### Causa confirmada

O único `MID360_config.json` versionado misturava dois eixos independentes:
host receptor `.2` e unidade transmissora `.158`. O setup copiava o par sem
olhar a máquina local. Foi exatamente essa combinação que subiria aparentemente
normal no notebook `.5` e deixaria a nuvem voltar para o endereço errado.

Além disso, os registros não sustentam mais “só há um Mid-360” como fato:

| quando/onde observado | IP | MAC |
|---|---|---|
| 15-09, junto ao NUC / robô 2 | `.158` | `e4:7a:2c:95:df:da` |
| 24-09, junto ao notebook / robô 3 | `.169` | `e4:7a:2c:90:1d:f1` |

Isso sugere duas unidades, mas não substitui conferir etiquetas/números de
série. O inventário ficou aberto na decisão 058; nenhum dos IPs ganhou nome de
robô.

### Mudança

- perfis `nuc=.2/24` e `notebook=.5/24` descrevem **só a máquina**;
- o JSON fixo `.2/.158` virou template sem IP real;
- sem `--lidar-ip`, o setup varre a rede e exige exatamente um respondente com
  OUI Livox; com o argumento, a escolha fica explícita e um sensor desligado
  gera aviso `NÃO confirmado` em vez de falsa prova;
- IP e máscara do host têm de existir em exatamente uma interface local;
- toda essa conferência ocorre antes do passo 0/5, logo antes de clone, SDK,
  `/usr/local` ou build;
- o JSON gerado é copiado para o clone e conferido com `cmp`.

### Prova offline

| prova | resultado |
|---|---|
| `bash -n setup_livox.sh` | ✅ |
| `python3 -m py_compile tools/prepara_config_livox.py` | ✅ |
| testes dirigidos da decisão 058 | ✅ **15 passed** |
| suíte de `robot_base` inteira | ✅ **127 passed** |
| preflight real neste dev sem `.5/24` | ✅ recusou com rc=1 e listou os IPs presentes |
| clone/SDK criados pela prova negativa | ✅ nenhum |

Foi tentado também `pytest -q` da raiz nesta worktree. A execução não serve de
veredito porque a worktree isolada não tem `install/`: a primeira falha
reproduzível veio só depois de **570 passes**, com
`PackageNotFoundError: robot_motion`; o `AMENT_PREFIX_PATH` herdado listava
`Controle_robo_web` e `/opt/ros/jazzy`, não este workspace. Não foi feito build
aqui nem usado o `install/` que o item 3 reconstrói no diretório original. A
suíte completa continua sendo a prova separada daquele item.

O Mid-360 permaneceu desligado e nenhuma interface foi alterada. Logo ainda
faltam a prova da varredura automática, a geração/cópia no notebook ou NUC e o
stream real após um setup. O BO do `--packages-select` sem
`hoverboard_driver` continua separado para o item 2; não foi corrigido aqui.

## 2026-09-24 (lab, robô 3) — MID-360, FAST-LIO, `/scan` E TF VIVOS; A CONFIG ATIVA É LOCAL E DESCARTÁVEL

Evidência bruta pequena preservada em
`docs/dados/2026-09-24-robo3-lio/` (logs, frequências, janela parada e
`SHA256SUMS`; nenhum bag).

Continuação da sessão abaixo, agora com o cabo Ethernet e o Mid-360 ligados.
O objetivo desta parte foi somente fechar a rede e provar a saída crua do
sensor. **O robô não recebeu objetivo e não se moveu.** Ao fim, o dono desligou
o lidar e pediu aviso explícito antes de tornar a ligá-lo.

### O que foi medido

| item | resultado |
|---|---|
| interface do lidar | `enp1s0`, perfil NetworkManager `livox`, host `192.168.1.5` |
| Mid-360 encontrado | `192.168.1.169`, MAC `e4:7a:2c:90:1d:f1` |
| `/livox/lidar` | **10,2 Hz**, `livox_ros_driver2/msg/CustomMsg`, **20 064 pontos/quadro**, `frame_id: livox_frame` |
| `/livox/imu` | **199,8 Hz** |
| log do driver | `Init lds lidar success`, modo de trabalho `Normal`, IMU habilitada |

Isso prova a ligação Ethernet, o comando do sensor e os dois fluxos crus.
**Não prova FAST-LIO, `/Odometry`, `/scan`, TF completa, mapa, AMCL, Nav2 nem
atuador.** Nenhum desses elos foi exercitado nesta parte.

### O ajuste que fez os pacotes chegarem — e por que ainda não é solução

O JSON versionado em `robot_base/config/` descreve o NUC/Livox do robô 2:
host `192.168.1.2`, sensor `192.168.1.158`. Neste notebook, porém, a interface
já estava em `.5` e o sensor presente respondeu em `.169`. O driver pode subir
e comandar o lidar com o host errado, mas a nuvem não volta para o endereço em
que o notebook realmente está.

Não foi possível trocar a interface para `.2` porque o NetworkManager pediu
senha de `sudo`. Foi alterada **somente a cópia local, ignorada pelo git**, em
`ros2_packages/livox_ros_driver2/config/MID360_config.json`: os quatro campos
de host passaram de `192.168.1.2` para `192.168.1.5`. O IP do lidar nessa cópia
já era `.169`. O arquivo versionado do robô 2 ficou intacto.

Esse ajuste é deliberadamente provisório: `setup_livox.sh` copia o JSON
versionado por cima do clone, e um reclone também elimina a cópia ativa. Logo,
**rodar o setup neste notebook devolve `.2/.158` e quebra o fluxo que acabou de
ser medido**. Configuração por máquina continua uma decisão em aberto; não foi
resolvida escondendo os números do robô 3 no arquivo do robô 2.

### O pedido de “carregar um mapa e mandar um ponto à frente” ainda não é um launch

A leitura do estado versionado encontrou uma trava intencional: a `main`
recusa `robo:=3` na `pilha.launch.py`. A branch
`origin/etapa6-pilha-robo3` já ensina a pilha a montar o perfil 3, mas somente
com `sim:=true`; `robo:=3 sim:=false` continua recusado porque faltam a
fronteira do atuador real e a localização real. Portanto não é seguro subir o
robô 3 fingindo que ele é o robô 2 só para mandar um goal.

**Estado naquela pausa:** lidar fisicamente desligado pelo dono. O launch do
driver tinha PID `1537986` na última observação e ainda não tinha sido
consultado; seu estado ficou **desconhecido** até a retomada abaixo.

### Segunda parte — localização inteira, ainda sem tração

Depois do aviso explícito, o dono ligou somente o lidar; placa e motores
continuaram desligados. A primeira leitura corrigiu o estado desconhecido: o
launch `1537986` **continuava vivo** e retomou o fluxo quando o sensor voltou.
A configuração instalada era um symlink para a cópia `.5/.169` acima. Com um
único publicador, a nova medida deu `/livox/lidar` **9,97 Hz** e `/livox/imu`
**200,1 Hz**.

O driver isolado foi encerrado com `SIGINT` e saiu. Em seguida subiu apenas
`robot_base/localizacao.launch.py`: driver, FAST-LIO, `tf_odom`, conversor
`CustomMsg → PointCloud2` e `scan_2d`. **Nenhum nó de tração, mux, MEGA ou
comando de velocidade subiu.**

O primeiro resultado separou exatamente o elo ausente: o FAST-LIO inicializou
a IMU e o mapa k-d, `/Odometry` nasceu, e a primeira nuvem convertida teve
18 652 pontos; mas o `tf_odom` recusou publicar porque não existia
`livox_frame → base_link`. Era a ausência já prevista de
`robot_state_publisher` quando a localização do robô 3 sobe sozinha. Para medir
somente a árvore, foi iniciado um RSP avulso com o `robo3.urdf.xacro`, sem
serial, mux ou atuador. A TF estática apareceu e o `tf_odom` publicou a primeira
TF composta.

| medida, robô parado | resultado |
|---|---|
| `/Odometry` | **10,33 Hz**, `camera_init → body` |
| deriva máxima em 15 s | **8,5 mm** em xy; **8,0 mm** em z; **0,274°** em yaw |
| `/livox/pontos` | **7,25 Hz**, `PointCloud2` |
| `/scan` | **7,24 Hz**, 360 raios em `base_link` |
| raios finitos por scan | mediana **355**, mínimo **352** |
| alcance finito observado | **0,350–6,840 m** |
| `base_link → livox_frame` do URDF | xyz **(−0,093; 0; 0,240) m**, RPY **(0; 0; 0)** |

A deriva é uma janela curta, não calibração. E a última linha é o valor
**provisório do URDF**, não uma pose 6D medida no robô: a etapa 7 ainda precisa
medir x/y/z/roll/pitch/yaw e provar o sinal do yaw. Do mesmo modo, os cortes do
`scan_2d` seguem herdados; 355 raios válidos provam que há scan, não que ele
esteja geometricamente certo contra o mapa nem que preserve obstáculo junto ao
nariz.

O custo também ficou medido no instante da janela: `nuvem_pontos` usou **97,5%
de um core**, driver **28,5%** e FAST-LIO **34,1%**. É compatível com a dívida já
conhecida da ponte Python e explica `/livox/lidar` a ~10 Hz virar
`/livox/pontos`/`/scan` a ~7,2 Hz; não foi otimizado nesta sessão.

O launch upstream tentou abrir RViz no notebook sem tela e o processo morreu
com erro do Qt (`exit -6`). Os cinco nós úteis permaneceram vivos e todas as
medidas acima vieram depois disso. É ruído real de bringup a retirar depois,
mas **não** foi confundido com falha do LIO.

### Encerramento — o driver saiu antes de cortar a energia

No pedido para desligar, `SIGINT` dirigido apenas ao launch iniciado por
`setsid nohup` foi ignorado. `SIGTERM` encerrou o pai, mas deixou os filhos
órfãos no PGID `1695964`. A limpeza correta foi pelo **grupo inteiro**:

1. `SIGINT` no grupo encerrou driver Livox, FAST-LIO, `scan_2d` e RSP;
2. `SIGTERM` no mesmo grupo encerrou os dois nós Python restantes
   (`tf_odom` e `nuvem_pontos`);
3. conferência final por processos **e** grafo ROS: lista vazia.

Não houve `SIGKILL`, e o dono só desligou o lidar depois da confirmação. Isso
repete a razão de o `sobe-robo3` registrar PGID: sinalizar só o pai não garante
que a árvore morreu.

### O que ficou aberto

- mapa, AMCL, Nav2 e objetivo **não foram testados**;
- a pilha física do robô 3 continua bloqueada de propósito no código;
- a pose 6D do lidar e a percepção perto do corpo continuam provisórias;
- a configuração `.5/.169` continua descartável dentro do clone;
- nenhuma roda foi energizada e o robô não se moveu.

**Estado final:** lidar desligado pelo dono, nenhum processo/nó relevante vivo.
Próxima ação de hardware só depois de novo aviso e novo “pode”.

## 2026-09-24 (lab, robô e lidar DESLIGADOS) — O NOTEBOOK DO ROBÔ 3 VOLTA PARA A `main`, E EU QUASE REGISTREI UM ESTADO QUE NÃO EXISTIA MAIS

Sessão curta e só de PC: a bateria do robô 3 estava carregando, então o lidar
ficou desligado e nada de hardware foi exercitado. O pedido do dono foi
"arruma o PC por agora".

**Rede:** os dois lados na `Trafico de banana` (dev `10.127.116.5`, notebook
`10.127.116.150`). A primeira tentativa foi da `Visitantes` e não passava ping
em ninguém — mesmo tropeço de 22-09, agora conferido antes de qualquer coisa.

### O erro de método do dia: trabalhei 40 min com uma `main` de nove dias

Abri a sessão lendo o `ESTADO_PROJETO.md` e o `git log` **locais**, sem
`git fetch`. Eles diziam "etapa 5 fechada na branch, esperando o ok do dono" —
e foi isso que eu repeti para o dono, e foi com base nisso que sincronizei o
notebook com `f23ac4f`. Só na hora de empurrar o commit é que a `origin`
recusou: **a `main` já estava 16 commits à frente** (`cc064fb`), porque em
23-09 a etapa 5 inteira foi para a `main`, a coleta do pytest virou seleção
positiva e nasceu a decisão 055. Existe ainda a branch `etapa6-pilha-robo3`
com corridas exploratórias da etapa 7 **de hoje**, que não são desta sessão.

Ou seja: eu implantei no notebook um estado que era o correto *na semana
passada*. Ninguém se machucou porque o alvo era só sincronizar, mas o registro
que eu tinha escrito afirmava "a etapa 5 NÃO foi para a `main`" — falso, e ia
para o artigo. **A lição, escrita para valer: `git fetch origin` ANTES de ler o
estado, não depois de trabalhar nele.** O `ESTADO_PROJETO.md` é handoff entre
máquinas justamente porque outra máquina mexe nele; lê-lo sem sincronizar é ler
o handoff de ontem achando que é o de hoje.

Correção aplicada: `reset --hard origin/main`, notebook re-sincronizado com
`cc064fb` e recompilado, e esta entrada reescrita sobre o estado real.

### Pré-voo: o notebook estava nove dias atrás

| o quê | estado encontrado |
|---|---|
| repo em `~/Workspace/Controle_robo_livox` | `fa828f4` (15-09) |
| pilha ROS de pé | nenhuma |
| MEGA | `/dev/ttyACM0` |
| `enp1s0` (cabo do lidar) | **DOWN, sem IP** |
| `git fetch origin` de lá | publickey (esperado: a chave de lá é de outra conta) |

### O BO do `setup_livox.sh` é do script, não da máquina — e a 055 não o cobre

Havia dois logs soltos no notebook (`log_setup_livox.txt`, `log_build.txt`) de
22-09. O `setup_livox.sh` **reprovou no próprio passo 5/5**, exatamente como o
registro de 10-09 previa:

```
Failed to find the following files:
- install/hoverboard_driver/share/hoverboard_driver/package.sh
```

O `colcon build` do script é `--packages-select livox_ros_driver2 fast_lio
robot_base`, e o `robot_base` exige o `hoverboard_driver` **instalado** — que
não está nessa lista. **Mas um `colcon build` comum logo depois passou**, com
os oito pacotes, `fast_lio` incluído (1min59s). O ambiente do notebook está
bom; o defeito é a lista de pacotes do script.

Conferi contra a `main` de hoje: a decisão **055** (`c6a7b46`) endureceu o
script noutro ponto — fixa o SDK nativo e recusa cedo — e a linha do
`--packages-select` **continua igual**. Então este BO segue aberto, e é
diferente do que a 055 resolveu. Sem conserto hoje: mexer nele é mudança de
código e não vai blind.

### Deploy e build

Como o notebook não alcança o GitHub, o caminho continua sendo o repositório
bare de lá: `git push notebook main:main` daqui, e no notebook
`git fetch notebook && git reset --hard notebook/main`.

Resultado final: notebook em **`cc064fb`**, e
`colcon build --base-paths ros2_packages --symlink-install --packages-skip
livox_ros_driver2 fast_lio` → **rc=0**, 6 pacotes em 8,0 s (é o comando que o
próprio ESTADO manda usar). Pulei os dois de terceiro de propósito: o fonte
deles não mudou e já estavam compilados. Com o overlay carregado, o
`ros2 pkg list` mostra os oito: `robot_base`, `robot_motion`, `robot_nav`,
`robot_planning`, `wheel_msgs`, `livox_ros_driver2`, `fast_lio`, `twist_mux`.

### O achado: o driver do Livox guarda o IP da outra unidade

O `MID360_config.json` **de dentro do `livox_ros_driver2`** (que é o que o
driver lê) tem `192.168.1.169`; o versionado em `robot_base/config/` tem
`192.168.1.158` desde o commit `56e6bda`. Não é corrupção: o `setup_livox.sh`
copiou a config do checkout de 15-09, quando o valor versionado ainda era o
`.169`. O `reset --hard` atualiza o versionado e **não** a cópia de dentro do
clone, que está no `.gitignore` — é exatamente o modo de falha que o
`README.md` da config descreve, com os nós subindo e nenhuma nuvem chegando.

**Não corrigi**, e de propósito: o lidar está desligado, e o mesmo README é
explícito em que a varredura da sub-rede é a fonte da verdade — o número
commitado é só o último conhecido, e o último octeto acompanha o número de
série da unidade. Copiar `.158` por cima agora seria trocar um palpite por
outro sem medir.

### 🔴 O que esta sessão NÃO prova

Hardware nenhum. O lidar não foi ligado, o `enp1s0` não recebeu IP, a MEGA não
falou com a placa e o robô não se moveu. A única afirmação é sobre o PC: o
notebook do robô 3 está em `cc064fb` e compila.

**Próximo, quando a bateria voltar:** cabo no `enp1s0`, IP fixo `192.168.1.2`
nele, varredura `192.168.1.x` atrás do OUI `e4:7a:2c` para confirmar o IP do
lidar e só então acertar a config de dentro do driver.

## 2026-09-23 (PC de dev, robô desligado) — A ETAPA 5 VAI PARA A `main`, E A SUÍTE PARA DE DEPENDER DE `--ignore`

Sessão de dev, offline. Peguei o trabalho de 22-09 que veio do lab: a
`etapa5-contrato` remota tinha sido **rebaseada** (force-update), e o meu local
estava 10 à frente / 14 atrás. Antes de qualquer reset, conferi que
`origin/backup/etapa5-contrato-antes-rebase-22-09` apontava **exatamente** para
o meu `bfb6686` — os 10 commits locais eram as versões pré-rebase dos mesmos,
nada exclusivo a perder. `main` por `--ff-only`, branch por `reset --hard`.

### Quatro textos errados, achados na revisão de fechamento (`a283213`)

| onde | o que estava errado |
|---|---|
| `054` §Status | citava `e66d06b` e `4ab61b9` — **SHAs que não existem no repo**, sobras do pré-rebase. Certos: `e12b1f4` e `ba32571` |
| `PLANO` §3.4 | a *especificação* do gate ainda mandava diffar contra `0c70691`; a baseline andou para `f23ac4f` |
| `ESTADO` e este diário | "a etapa 5 só toca `robot_nav/`, `tools/` e `docs/`" — por `git diff --name-only f23ac4f HEAD`, toca também `bin/` e o próprio `ESTADO_PROJETO.md`. O gate passava igual: errada era a **descrição**, não o resultado |
| BO do `twist_mux` | estava escrito como problema de um pacote; é **causa geral** (abaixo) |

**Não mexi** nas citações históricas a `0c70691` (`PLANO` 126 e 142, este
diário 16 e 40): lá o número é fato do dia, não especificação.

Gate reconferido depois do commit de texto, e aí sim `git merge --ff-only`:
**`f23ac4f..a283213`**, sem merge commit. Plano §9 cumprido.

### O `--ignore` não era do `twist_mux` — era da coleta

Reproduzindo a suíte em shell limpa (só `/opt/ros/jazzy`, sem o overlay do
`Controle_robo_web`, que estava carregado aqui), apareceram **2 falhas que
ninguém tinha visto**: `test_flake8` e `test_pep257` do `robo_exemplos`, dentro
de `ESTAGIO-2026/` — diretório local, ignorado pelo git, que não é deste
projeto. Os 1237 próprios passavam igual, mas o **código de saída virava 1**.

Ou seja: o BO de 22-09 não era "o `pytest` pendura no `twist_mux`". Era **o
`pytest` da raiz coleta diretório local ignorado pelo git**, e o `twist_mux`
foi só o primeiro a doer. Exclusão por nome nunca fecha isso — o próximo
diretório clonado ao lado entra sozinho de novo.

**Fechado por seleção positiva** (`pytest.ini` com `testpaths`, os 13 caminhos
do projeto). `pytest` sem argumento coleta só o nosso; `pytest
ros2_packages/twist_mux` continua alcançando terceiro quando a gente quiser
(conferido: coleta explícita em `ESTAGIO-2026` segue funcionando).

**O risco que a seleção positiva cria, e a trava:** o modo de sumir se inverte
— em vez de teste de terceiro entrando, é teste NOSSO saindo em silêncio,
verde por não ter rodado. É a mesma família da zona morta: falha sem sintoma.
`test_coleta_da_suite.py` fecha: todo arquivo de teste do `git ls-files` tem de
cair sob algum `testpaths`, e todo `testpaths` tem de existir no disco.
**Nasceu verde** — mutei os dois lados para provar que pega:

| mutação | resultado |
|---|---|
| tirar `tools/banco` do `testpaths` | ❌ `test_todo_teste_versionado_esta_no_testpaths` |
| pôr entrada inexistente no `testpaths` | ❌ `test_nenhum_testpaths_morto` |
| restaurado | ✅ 2 passed |

**Suíte: 1239 passed, código de saída 0, sem `--ignore` nenhum** (1237 + os 2
da trava).

### Dois resíduos do PC, e um BO que fica aberto

- `build/wheel_msgs` de 14-09 tinha diretório real onde o `--symlink-install`
  queria link: o build morria em `ament_cmake_python_symlink`. Apagado
  `build/` e `install/` do pacote, rebuildou. Artefato local, fora do git.
- 🔴 **O SDK Livox não está instalado neste PC**: `colcon build` reprova em
  `LIVOX_LIDAR_SDK_LIBRARY` não encontrada, e o `install/livox_ros_driver2`
  daqui é de antes. O build do dia foi com `--packages-skip livox_ros_driver2
  fast_lio` (6 pacotes, código 0). **A etapa 6 não deve começar apoiada nesse
  `install/` velho** — ou instala o SDK, ou a ausência vira registro formal.
- **D4 segue aberta de propósito**: `/joy` sumindo deixa o último frame
  não-zero e quem para o robô é o watchdog do firmware. É decisão de
  comportamento, não saneamento de suíte — não entra aqui.

### Tarde: a pilha de localização não compilava neste PC (decisão 055)

Preparo da etapa 6. `colcon build` reprovava em `LIVOX_LIDAR_SDK_LIBRARY`, e o
diagnóstico achou **três coisas velhas**, nenhuma de hoje:

| achado | o que era |
|---|---|
| SDK compilado em 24-07, **nunca instalado** | o `sudo cmake --install` não completou; a `.so` estava em `third_party/.../build` |
| `install/livox_ros_driver2` | **casca de 6 arquivos** — só escrituração do colcon, zero lib, zero mensagem, sem `ament_index`. Não era build velho: era rastro de build que falhou |
| `MID360_config.json` do clone | ainda com **`192.168.1.169`**, o IP que a varredura de 15-09 achou mudo. O versionado tem `.158` desde `56e6bda` |

O terceiro é o que me preocupou: IP errado = `bind failed` = FAST-LIO sem
nuvem = `/Odometry` nunca publicado. Quem investiga vai olhar o FAST-LIO, e o
defeito está num JSON dentro de um clone descartável. O passo 4 do setup
conserta isso de graça — ele só nunca tinha rodado depois de 15-09.

**Antes de rodar o script, fixei o SDK** (055): ele era o único dos três
terceiros clonado sem revisão (`--depth 1`, `main` do dia). O que vai para
`/usr/local` é código nativo, fora do git, que nenhum teste nosso cobre —
numa máquina nova seria outra lib, sem aviso. Mesma família da zona morta.
Conferi antes de escolher o valor: o clone daqui está em `v1.3.1` /
`f5d9375…`, limpo. E **recusa** revisão diferente em vez de resetar sozinho —
provado em sandbox: para em 1/5, código 1, nada clonado.

**O script pediu sudo e eu parei.** Não rodo `sudo` no escuro nem peço senha;
conferi que `sudo -n true` não alcança minha shell (*"a password is
required"*) e devolvi o comando. O dono rodou.

**E aí o `fast_lio` reprovou** — `By not providing "Findpcl_ros.cmake"`, com o
SDK **já instalado em `/usr/local`**. Ou seja: o script mexeu no sistema e só
no passo 5/5 descobriu que o ambiente não dava conta, com um erro de CMake que
não diz o que instalar. Faltava o `ros-jazzy-pcl-ros`, declarado em
`FAST_LIO/package.xml:28`.

Isso virou o **passo 0/5**: pré-condição de dependências ROS, antes de
`/usr/local` e antes do clone, com o `apt install` exato na tela. Lista fixa, e
não lida dos `package.xml`, porque roda **antes** do clone — em máquina nova
não há `package.xml` para ler. **Tive a sorte de poder provar vermelho contra o
defeito real**, não contra sandbox: com o `pcl_ros` ainda ausente, o 0/5 parou
com código 1 e apontou só ele (o `pcl_conversions` já existia).

Depois do `apt` do dono: `rc=0`, três pacotes, e as quatro validações —
`ldconfig` ✅, `ros2 pkg prefix` dos dois ✅ (o `CustomMsg` aparece no grafo),
`cmp` das configs idêntico (`.158`) ✅, **1239 passed** código 0 ✅.

🔴 **O que isto NÃO é:** localização. O lidar não foi ligado, a rede dele não
foi tocada, e compilar o FAST-LIO não é publicar `/Odometry`. Que o `.158`
responda é crença da varredura de 15-09, não medição de hoje. E conserta o
clone **deste PC** — o NUC pode estar com outra revisão de SDK, sem `pcl_ros`
e com o `.169` velho. Virou tarefa explícita de deploy da etapa 6.

**Nada foi ao robô hoje.** O robô ficou desligado a sessão inteira.

---

## 2026-09-22 (lab, robô desligado, sessão da tarde) — ETAPA 5 FECHADA: O PASSO 6, E DUAS CORREÇÕES QUE TIVERAM DE SAIR DA BRANCH

Sessão no laboratório, mas **inteiramente offline** — o robô ficou desligado e
o NUC fora de alcance (este PC estava na `Visitantes`, não na
`Trafico de banana`). Trabalho de fechamento da etapa 5: decisão 054, diário,
estado e o gate do §3.4.

### O gate reprovava, e não por causa da etapa 5

Primeira coisa ao abrir o passo 6: rodar o gate do §3.4 (`git diff 0c70691`
sem arquivo de `robot_motion/`, `robot_base/`, `robot.launch.py` nem
`twist_mux.yaml`). **Reprovou**, num arquivo só:
`robot_base/test/test_placa_simulada.py`, do commit `199fe30`.

Tentação óbvia: "é arquivo de teste, não muda o robô, abre ressalva". O dono
recusou — o gate vale ao pé da letra. Segunda tentação, minha: tirar o commit
da branch e pronto. **Antes de cortar, medi**: revertendo só aquele arquivo e
rodando a suíte inteira, **31 reprovações e 18 erros**, incluindo o canário
`test_os_carregadores_nao_estragam_o_rclpy_dos_outros_testes`, que existe
exatamente para isso. Ou seja: a correção não era penduricalho na branch, era
**dependência** dela.

Daí saiu o conflito de três pontas, que vale registrar porque é geral: *sair
da ancestralidade da branch*, *suíte verde* e *gate literal contra um hash
fixo* não cabem juntos, porque qualquer ancestral que contenha a correção
aparece no `git diff` daquele hash. A saída foi mover a baseline: a correção
virou commit próprio na `main` (`5e12f0e`) e a branch foi rebaseada em cima.
**A baseline andou para não relaxar o gate** — é o contrário de afrouxar.

Controle rodado antes de acreditar nisso, porque o vermelho podia ser meu:

| rodada | resultado |
|---|---|
| `0c70691`, sem a correção | 21 failed, **1134** passed, 11 errors |
| `main` com a correção | 21 failed, **1136** passed, 11 errors |

Conjunto de falhas **idêntico** (conferido com `diff` das duas listas); a
correção só soma os 2 canários. O vermelho era de ambiente, não dela.

### O vermelho de ambiente: este PC nunca tinha compilado a etapa 4

As 21+11 saíram de uma vez: `colcon build` neste PC (7 pacotes) e `source` do
`install/` **deste** repo. O shell do lab vinha com `AMENT_PREFIX_PATH`
apontando para o `Controle_robo_web` (robô 1) e para o `~/ros2_ws` — o overlay
errado. De 21 falhas para **1**.

Vale para o próximo handoff entre PCs: `git reset --hard` não basta, o
`install/` é por máquina.

### A falha que sobrou era a trava mentindo — e era defeito de verdade

`test_os_argumentos_batem_com_a_trava` reprovava **aqui e não no outro PC**,
com 6 argumentos "novos" na `base.launch.py`: `config_file`, `config_path`,
`rviz`, `rviz_cfg`, `use_sim_time` e `frame_da_pose`.

Causa medida: a `base.launch.py` inclui a `localizacao.launch.py`, que inclui
o `fast_lio` e o `livox_ros_driver2`. **No PC onde a trava foi capturada esses
pacotes não existiam**; a `localizacao.launch.py` estoura ao ser carregada sem
eles (o `_share` levanta `RuntimeError`), o `get_launch_arguments` engole a
exceção e pula o subárvore **calado**. A trava gravou só `congela_parado` — e
**nunca viu o `frame_da_pose`**, que é NOSSO e existe desde 17-09 (decisão
050). Aqui, com os pacotes instalados, o include resolve e tudo aparece.

Quer dizer: a trava do passo 0 estava codificando a *ausência* do `fast_lio`,
e deixou passar sem registro um argumento nosso. Defeito anterior à etapa 5 e
já na `main` — então, de novo, correção isolada na `main` (`f23ac4f`), não na
branch.

**A regra nova**: a extração desce pelos launches dos nossos pacotes e **para
no primeiro include de terceiro**; e roda com um **esqueleto fixo** de
`ros_gz_sim`, `fast_lio` e `livox_ros_driver2` na frente do
`AMENT_PREFIX_PATH`, para os nossos launches carregarem igual com ou sem o
terceiro instalado. Invariância medida: com `fast_lio` visível e invisível, a
linha de base sai **idêntica**.

Preço assumido e escrito no extrator: upgrade do `ros_gz_sim` que mude
`gz_args` não é mais pego por esta trava. Ela passa a responder só por
argumento nosso, que é o que o §8 promete.

### Duas armadilhas dentro dessa correção

**1. A API do `launch` mente sobre a cadeia.** O
`get_launch_arguments_with_include_launch_description_actions` devolve, para
cada argumento, uma lista de includes — e eu ia filtrar por ela. Não dá: a
lista é **um objeto só**, compartilhado entre os irmãos do mesmo nível e
mutado depois de guardado. O `frame_da_pose` vinha com o `fast_lio` e o
`livox` na "cadeia", sendo que os dois são includes **irmãos**, declarados
DEPOIS dele no mesmo arquivo. Se eu tivesse confiado nisso, teria jogado fora
exatamente o argumento que queria salvar — e o teste passaria. A caminhada
passou a ser nossa, espelhando a do `launch`.

**2. O esqueleto vazio fazia o teste passar com a fronteira quebrada.**
Mutação M3 (voltar para a API poluída, sem fronteira nenhuma): **passou**.
Motivo: com os esqueletos declarando zero argumentos, não havia nada de
terceiro para ser cortado — a fronteira não estava sendo testada, só o
esqueleto. O esqueleto agora declara um **canário**, e M3 morre.

| mutação | quem pega |
|---|---|
| fronteira aberta (tudo vira "nosso") | `batem_com_a_trava`, `separa_o_nosso`, `canario` |
| sem o esqueleto | `presente_ou_ausente_dao_a_mesma` |
| volta para a API poluída do `launch` | `batem_com_a_trava`, `canario` |
| include indecifrável vira "nosso" | `separa_o_nosso` |

Detalhe que evitou um apagamento silencioso: reger o YAML inteiro promoveu o
`robo: '2'` a argumento de sempre, matando o mecanismo de `NOVOS_PERMITIDOS`
do §8. Tirei a linha à mão — o `robo` continua sendo adição deliberada da
etapa 4, registrada como tal.

### Fechamento

- Baseline do gate: `0c70691` → `5e12f0e` → **`f23ac4f`**, dois commits, os
  dois de infraestrutura de teste, nenhum toca comportamento de robô.
- Gate do §3.4 contra `f23ac4f`: **passa ao pé da letra** — a etapa 5 toca
  somente `bin/`, `docs/`, `ros2_packages/robot_nav/`, `tools/` e
  `ESTADO_PROJETO.md`. (Escrito primeiro como "só `robot_nav/`, `tools/` e
  `docs/`": o gate passava do mesmo jeito, mas a descrição era inexata —
  corrigida em 23-09 contra `git diff --name-only f23ac4f HEAD`.)
- Suíte: **1237 passed**, código de saída 0. Na `main`, 1174.
- Decisão 054 escrita (a fronteira, as alternativas, o que não prova, e a
  baseline).
- Backup do estado anterior ao rebase: branch
  `backup/etapa5-contrato-antes-rebase-22-09`, no GitHub.

🔴 **Nada disto encostou em hardware.** A etapa 5 continua sendo prova de
software; o robô 3 não navega (etapa 6) e o D4 segue em aberto.

⚠️ Registrado sem conclusão: o `pytest` da raiz **pendura** no
`ros2_packages/twist_mux` (vendorizado, no `.gitignore`, teste de `launch` de
terceiro que faz `while priority is None: pass`). Antes da correção do
carregador ele errava rápido; com o rclpy real, gira para sempre. As rodadas
desta sessão usaram `--ignore=ros2_packages/twist_mux`. O diário de 21-09 já
tratava esses 8 como "não são nossas" — agora eles custam a suíte inteira, e
isso merece decisão própria (excluir de vez? `pytest-timeout`?).

---

## 2026-09-22 (dev, sem robô) — ETAPA 5, PASSOS 1–5: A CADEIA DO ROBÔ 3 FALA `TwistStamped`

Evidência: `docs/dados/2026-09-22-etapa5-contrato/` (13 pastas, README,
`SHA256SUMS`). Branch `etapa5-contrato`; a `main` só recebe a etapa inteira.

**Plano** (`docs/PLANO_ETAPA5_ROBO3.md`, `9b26ec3`), aprovado com seis
correções do dono. Achado que mudou o desenho: o `cmd_vel_to_wheels` **não é
só do robô 3** — o `robot.launch.py` (via `launch.sh`) usa o mesmo nó em
`Twist` (DIARIO 1331, decisão 049). Por isso D1 = parâmetro `use_stamped`
com **default cru**, e não adaptador nem troca de tipo.

**Passo 2 — caracterização da cadeia `Twist`.** Bancada nova
(`bin/valida-etapa5`, `tools/valida_etapa5/`), com a segurança COPIADA da
etapa 4 (evidência congelada, não refatorada). 26/26 (`142601`), com o que a
cadeia faz hoje: prioridade do direcional, timeout do mux (analógico volta em
0,35 s), homem-morto, e **perda do controle com o último frame NÃO-ZERO** —
só o watchdog do firmware pararia o robô (D4, em aberto).

**Passo 3 — `cmd_vel_to_wheels` dual** (`f0ea415`): `use_stamped` (default
`false`), um caminho só para a cinemática, teste com o nó REAL, tipo conferido
no grafo, controle positivo e barreira de descoberta.

**Passo 4 — corte atômico** (`9c99c20`): `dpad_reto` em `TwistStamped` com
header (frame `base_link`, inclusive no zero de soltura), teleop stamped com
`frame` explícito, mux `use_stamped: true`, launch passando `use_stamped` ao
`cmd_vel_to_wheels`. Coerência dos dois lados de cada tópico travada, e o
legado provado cru.

**Passo 5 — bancada `stamped` 26/26** (`161655`): `joy_vel`, `dpad_vel` e
`cmd_vel` são `TwistStamped` no grafo, e **os números não mudaram** —
reprodução de 14-09 (−120 / 97), padrão de hoje (−120 / −256), o par que
isola o `linear_sign` (+120 / −256), prioridade, timeout em 0,35 s,
homem-morto, perda do controle e TF com yaw 0.

**Dois defeitos achados no caminho, nenhum do contrato:**
1. **régua do timeout estreita** (`141628`): um frame do direcional em
   trânsito chegou 2 ms depois da troca de fase. A régua passou a aceitar, até
   `t0 + 0,1 s` (dois períodos do `/joy`), só o frame da fase anterior, com o
   zero exigido nesse prazo (`8747c92`);
2. **aviso de descoberta lido como placa desligada** (`154816`): o
   `ros2 topic echo` imprime o aviso no stdout, e o `sobe-robo3` lia isso como
   defeito de placa. Reproduzido isolado (`155931`, 1 de 3 partidas frias, com
   a bateria a 4,9 Hz o tempo todo). Conserto em `c914c1c`, com quatro
   vereditos distintos e `battery_check.log`.

**E um defeito PREEXISTENTE da bancada de testes** (`199fe30`): o carregador
"sem ROS" do `test_placa_simulada.py` e do `tools/banco/test_banco.py` usava
`setdefault` + atributo e escrevia `object` por cima de `rclpy.node.Node` e de
`geometry_msgs.msg.TwistStamped` REAIS, para o processo inteiro. Inofensivo
até alguém subir nó de verdade depois deles — o teste do passo 3 foi o
primeiro. Agora os falsos substituem e são restaurados no `finally`, com
canário nos dois arquivos.

**Tropeços meus, todos registrados:** commitei o passo 3 com a suíte vermelha,
porque `pytest | tail -1 && git commit` mascara o código de saída (agora o
código é conferido direto); o primeiro vermelho do passo 3 rodou contra o
`install/` porque o `rootdir` do pytest muda quando se roda o arquivo direto
(uso `--rootdir=.`); a cópia instrumentada da MEGA ficou sem o `fases.yaml`;
`--no-daemon` não existe no `ros2 topic pub` e `--once` publica antes de a
assinatura casar; e o arranjo mínimo deixou um `mega_bridge` vivo, que a
bancada seguinte recusou — foi assim que eu soube.

Suíte da raiz: **1231**. Falta o passo 6: decisão 054 e o fechamento.

## 2026-09-22 (dev + Gazebo, sem robô) — ETAPA 4, PASSO 7: A VALIDAÇÃO FINAL — UMA PREVISÃO FALSIFICADA E UM DEFEITO REAL

Evidência completa em `docs/dados/2026-09-22-etapa4-passo7/` (sete pastas
inteiras, `SHA256SUMS`, README com commit, papel e veredito de cada uma).

**A bancada** (`bin/valida-etapa4`, `tools/valida_etapa4/`, roteiro
`docs/ROTEIRO_PASSO7_ETAPA4.md`, preparo `cba7639`): três cenários separados,
pasta nova por rodada, domínio ROS próprio e só localhost, `GZ_PARTITION`
própria, marca `VALIDA_ETAPA4_MARCA` herdada por tudo o que ela lança. Sinal
só com identidade: grupo classificado antes (líder com o STARTTIME
registrado, ou órfão com todos os membros marcados), cada PID reconferido
logo antes do kill; limpeza em `EXIT`; consulta ao grafo com erro reprova.
Isso veio de uma revisão do dono antes da primeira execução, que achou
cinco furos de isolamento na minha versão (sinal por PGID cru; varredura
por PID que sinalizava sem reconfirmar marca e starttime; `bool` que só
provava um grupo; `node list` com erro aprovado como vazio; saídas
antecipadas sem limpeza) — corrigidos com casos dirigidos e mutação.

**Robô 2 no Gazebo — APROVADO** (`125907`). Parâmetros: contra a v2 sem
nenhuma permissão, zero diferença; contra a original, só a permissão do
passo 2, usada; padding certo nos dois costmaps. `comparacao.yaml` é o diff
normalizado do §10.2. Corrida até (6,24 · 3,51): chegou em 29,55 s a 0,133
m (o coletor exibe o teto de 120 s — dívida conhecida), com dois timeouts de
costmap transientes no meio. Smoke, não medida.

**Robô 3 no Gazebo — a previsão falhou, e isso foi bom** (`130525`). A lista
de nós esperada, escrita antes, não tinha um `/transform_listener_impl_*`. O
resto passou, inclusive a previsão herdada dos 4 ilegíveis do
`controller_manager`. Atribuição por execução isolada (`131343`: só o
`scan_2d`, domínio 45, 3/3 consultas com exatamente um listener) e só depois
a expectativa (`e3c69f4`, cardinalidade 1, testada); rodada nova aprovada
(`131814`). Efeito colateral honesto: a atribuição dos 4 listeners do robô 2
estava errada em um nome — corrigida só no comentário (`5e630a3`), os três
do Nav2 "não atribuídos individualmente".

**MEGA fingida — um defeito real do 6a** (`132801`). O `sobe-robo3`
consultava o grafo pelo daemon; o daemon recém-nascido respondeu vazio com
código 0, e ele subiu por cima dos quatro externos de mesmo nome (o wrapper,
com `--no-daemon --spin-time 5`, os via). Interrompi; a limpeza pela marca
recolheu tudo. Os testes do 6a cobriam erro e travamento da consulta, **não a
resposta vazia com código 0 durante descoberta incompleta**. Conserto
`4d640f4` com vermelho antes. Rodada corrigida **APROVADA 24/24** (`133847`):
recusa real; frames exatos byte a byte nas duas condições (14-09 reproduzido
sob condições efetivas equivalentes: −120 / 97 / 0; hoje: −120 / −256 / 0);
TF viva `base_link → livox_frame` com yaw 0 e diferença 0 do URDF; só o grupo
registrado morreu, externos vivos com o mesmo starttime.

**Tropeços meus, anotados:** o `/dev/input/js0` que a pré-condição recusava é
um mouse virtual (`mouce-library-fake-mouse`, sem `ID_INPUT_JOYSTICK`) — a
regra "qualquer js* é controle" estava errada; virou a marca do udev
(`b0121b7`). Desfiz uma mutação com `git checkout` e apaguei a edição não
commitada junto (a suíte pegou; refeito com cópia). Afirmei que o `/joy` a
9,8 Hz era contenção do laço, e a rodada seguinte deu 20 Hz — retirado, fica
sem explicação. Antes de o dono corrigir, atribuí o daemon que sobrou a
`topic echo`/`hz`; a evidência só diz "algum comando do ROS CLI posterior à
consulta de conflitos".

**O que não prova:** nada de hardware; a corrida é smoke; a TF prova a
árvore fixa (rodas e bobas sem `/joint_states`). Suíte **1166**.

## 2026-09-22 (dev, sem robô) — ETAPA 4, PASSO 6b: O `controle_robo3` GANHA O RSP

**Por quê (D4):** sem `robot_state_publisher` não existe `base_link →
livox_frame`, e sem essa TF nada do Livox chega ao corpo do robô 3.

**Vermelho primeiro** — `robot_nav/test/test_controle_robo3_launch.py`, 13
casos, na launch de verdade: o `OpaqueFunction` roda num `LaunchContext` real
e devolve as ações sem executá-las (nenhum processo ROS sobe); o
`escolhe_joystick` é trocado por um falso, para o teste não abrir o
`/dev/input/js*` do PC. 5 reprovaram pelo motivo certo (0 RSP; URDF e TF do
Livox sem RSP; lista de nós sem ele; `package.xml` sem `robot_base`); 8
passaram e travam o que existia: os seis nós uma vez cada, nenhum
`joint_state_publisher`, os cinco argumentos com os defaults de hoje.

O URDF é conferido por **igualdade** com o `robo3.urdf.xacro` do
`share/robot_base` renderizado com `sim:=false`, e o teste exige que ele
difira do `sim:=true` (senão a igualdade não distinguiria nada). Achado no
caminho: o bloco `<ros2_control>` também tem `<joint>`, sem parent/child — o
teste da TF lê só as juntas de topo (`findall`, não `iter`). Lint: o
`importorskip` entre imports sempre bate no I100 do `ament_flake8` (o
`test_pilha_robo.py` vizinho tem o mesmo aviso); aqui `launch_ros` e `xacro`
são dependências declaradas, então import direto, ordenado.

**Conserto:** no `_monta`, um `Node` `robot_state_publisher` com nome fixo
(`robot_state_publisher`, o que o `sobe-robo3` procura no grafo) e o XML de
`xacro.process_file(share/robot_base/description/robo3.urdf.xacro,
mappings={'sim': 'false'})`, como o `sim_robo3.launch.py` já faz;
`<exec_depend>robot_base</exec_depend>` no `robot_nav`; docstring sem o "Sem
URDF". Nenhum argumento novo, nenhum default alterado.

13/13; `ament_flake8` limpo no teste e no launch; build de `robot_base` e
`robot_nav` (launch instalado idêntico ao fonte); suíte da raiz **1094**; sem
processo residual.

**Limite, que não é defeito do 6b:** o RSP fica configurado para publicar a
árvore FIXA, inclusive `base_link → livox_frame` (TF viva não provada aqui). Rodas e bobas são juntas contínuas e
ficam **sem TF dinâmica** até alguém publicar `/joint_states` — não há
`joint_state_publisher` de propósito (nada neste bringup mede ângulo de roda).
Não prova: o RSP subindo de verdade com a MEGA fingida e a TF viva — é o
critério §10.5, no passo 7.

## 2026-09-22 (dev, sem robô) — ETAPA 4, PASSO 6a: O `sobe-robo3` SÓ DERRUBA O QUE ELE SUBIU

**O defeito (D5, achado do dono em 18-09):** o `vivos()` escolhia quem matar
por NOME (`joy_node`, `twist_mux`, `teleop_twist_joy`…) na máquina inteira, e a
subida começava matando. Com o robô 2 ou o simulador no mesmo PC, derrubaria os
nós deles.

**Bancada sem namespace.** O AppArmor deste PC bloqueia user namespace sem
root (`apparmor_restrict_unprivileged_userns=1`; `unshare` e `bwrap` falham
dentro e fora do sandbox). O isolamento ficou por calços
(`tools/sobe_robo3/calcos/`): `BASH_ENV` troca `kill`, `pkill`, `killall`,
`sleep` e o `source` de setup por funções; o PATH começa por `kill`, `ps`,
`pkill`, `killall`, `pgrep` e `ros2` falsos. O `kill` falso valida os
argumentos como array (sem eval), com a semântica do procps (antes de alvo,
`-5` é sinal), e só entrega a PID/PGID que o teste criou. Rede de segurança
independente dos calços: todo descendente do script herda `CALCO=<dir do
teste>`, e ao fim de cada teste qualquer marcado desconhecido reprova e é
derrubado. `ROS_DOMAIN_ID=77` e só localhost na bancada, para o caso de um
`ros2` real escapar de novo. Os calços têm testes próprios (alvos proibidos,
`source` relativo, detector de vazamento). Estático: o fonte não pode ter
`pkill`, `killall`, `pgrep`, `xargs … kill`, `/bin/kill`, `/usr/bin/kill`,
`builtin kill`, `command kill`, `env kill`, `exec kill`, `\kill` nem `. arquivo`.

**Vermelho (script antigo, depois do incidente abaixo):** 21 reprovados, cada
um pelo motivo certo — mata por nome e sem `flock`; `--mata` sem registro
matou os 4 externos; registro obsoleto ignorado; PID reusado morto; membro do
grupo com líder morto sobrevivendo (filho com nome NEUTRO, para não morrer por
coincidência de nome — na primeira versão ele se chamava `mega_bridge` e o
script antigo o matava por acaso); 8 registros malformados aceitos; conflito
no grafo ignorado; `node list` falhando/travando tratado como "sem conflito";
subida matando externos; subida por cima de registro vivo; duas subidas
concorrentes passando as duas.

**O conserto:** registro `~/.local/state/sobe-robo3/grupos` (`PGID STARTTIME
PAPEL`, diretório 0700, arquivo 0600, escrita atômica com umask 077), cada
grupo registrado logo depois do `setsid`, com o PID conferido como PGID;
`/proc/PID/stat` lido depois do último `) `, inteiros validados, PGID 0/1/
negativo/malformado recusado, o arquivo inteiro validado antes de qualquer
sinal (teste de registro misto: linha boa + malformada → nenhum sinal).
Líder morto com membro vivo = nosso (o kernel não realoca PGID com membro);
líder existente com STARTTIME diferente = PID reusado, não toca. INT, até
10 s, KILL no que sobrar. `flock -n` em consulta, subida, registro e
`--mata`; o launch e o bag não herdam a trava (`9>&-`). Subida recusa com
registro vivo, com `/robot_state_publisher`, `/twist_mux`, `/joy_node` ou
`/teleop_twist_joy_node` no domínio, ou com `ros2 node list` falhando ou
passando de 10 s.

Tropeços meus no caminho, todos da bancada ou do conserto, não do vermelho:
o `ros2` falso nasceu sem bit de execução; os fingidos do launch/bag
ignoravam INT (o bash deixa SIG_IGN em processo de segundo plano) e o `--mata`
só terminava no KILL — viraram python com SIGINT padrão, como o launch real, e
o teste da subida limpa exige que o caminho normal não precise de KILL (o
KILL tem teste próprio, com um processo que ignora INT); a varredura do
`/proc` custava 0,57 s (um subshell por processo), caiu a 0,046 s numa
passada só; e o líder ZUMBI com membro vivo seria descartado como alheio —
corrigido antes do commit (zumbi ainda segura o PID, não houve reuso).

Revisão do dono antes do commit: (1) falha ao gravar o registro deixava o
grupo recém-criado ÓRFÃO — agora o `registra` derruba o grupo já confirmado,
remove o temporário e reprova, com teste de `mv` falhando (e mutação: sem o
`derruba`, o teste reprova com "grupo órfão vivo"). Para esse teste não ficar
instável, o calço de kill aceita também alvo cujos processos TODOS têm a marca
`CALCO` (o script pode sinalizar antes de o `ros2` falso se anotar; zumbi,
sem environ, não conta). (2) 16 erros de docstring do `ament_flake8` no teste
novo, corrigidos — a suíte verde não substitui o lint direto.

Suíte dirigida **52**; da raiz **1081**; `ament_flake8` limpo. Depois de cada
uma: nenhum processo marcado, nenhum ROS residual. Não prova: o comportamento contra a pilha real
do robô 3 (`controle_robo3` de verdade atendendo o INT em ≤ 10 s) — é o
critério §10.5, com MEGA fingida, no passo 7.

## 2026-09-22 10:45–10:59 (dev) — INCIDENTE: A BANCADA DO 6a SUBIU A PILHA REAL DO ROBÔ 3

**O que aconteceu.** Nas duas primeiras rodadas dos testes do 6a, contra o
script antigo, os testes de subida chamaram o `ros2` **real**:
`ros2 launch robot_nav controle_robo3.launch.py` (joy_node, teleop, twist_mux,
dpad_reto, cmd_vel_to_wheels) e `ros2 bag record`, no **domínio 0**, uma vez
por teste que chegava à subida. **56 grupos, 206 processos**, mais um
`ros2-daemon` iniciado às 10:45:55. O `--mata` antigo via o `ps` falso e não os
enxergava; ficaram vivos.

**Causa.** O calço de `source` só neutralizava `*/install/setup.bash`; o
script faz `source install/setup.bash`, **relativo**. O setup real rodou, pôs
`/opt/ros/jazzy/bin` na frente do PATH e o `ros2` falso deixou de ser o
encontrado. Um segundo defeito escondia o primeiro: o `ros2` falso estava sem
bit de execução, então a primeira rodada nem teria usado ele.

**O que NÃO houve.** Nenhum sinal a processo **pré-existente**: o `kill` estava
coberto pelo calço (só PIDs do teste) e não havia outro ROS no PC. A porta era
um arquivo falso em `/tmp`: nada chegou à MEGA nem ao robô (desligado).

**Risco potencial.** O `joy_node` real abre `/dev/input/js*`: um controle ou
joystick pareado com este PC na janela 10:45–10:59 pode ter sido lido e
publicado em `/joy` no domínio 0. Não há registro de que havia um.

**Limpeza.** Grupos identificados pelo caminho `/tmp/pytest-of-…` nos
argumentos do líder e derrubados **só eles** (INT, depois KILL). O
`ros2 daemon stop` travou; o daemon foi derrubado pelo PID, conferido o
horário de início. Depois: nenhum processo ROS no PC. Os 90
`/tmp/launch_params_*` ficaram — não dá para atribuí-los inequivocamente.

**Defesas que entraram por causa dele:** `source` de qualquer `setup.bash`
(relativo ou absoluto) e de `/opt/ros/*` neutralizado, com teste de que o PATH
não muda e o `command -v ros2` é o falso; detector de vazamento pela marca
`CALCO`; `ROS_DOMAIN_ID=77` e só localhost na bancada. **Lição:** calço que
depende de casar caminho falha em silêncio; a rede de segurança tem de ser
independente do calço estar certo.

## 2026-09-22 (dev, sem robô) — ETAPA 4, PASSO 5: O REFLEXO COERENTE POR PERFIL, E O TESTE NASCE VERDE

`test_reflexo_por_perfil.py`, 15 casos, sobre o perfil **montado** (os dois
YAMLs depois do `aplica_reescritas`), comparando geometria — vértices lidos
do texto, contenção por semiplano (externo convexo exigido), área, e o mesmo
polígono a menos do vértice de partida e do sentido (CW/CCW):

- **robô 2:** a regra da 032 exatamente — o footprint dos dois costmaps é o
  `PolygonStop`;
- **robô 3:** Approach e Stop, cada um, contêm o footprint dos dois costmaps e
  têm área maior. Entre Approach e Stop nada se exige (políticas distintas, D3).

**Nasceu verde, e corretamente.** O comportamento que ele trava entrou no 4c
(os polígonos do robô 3 já são footprint + margem). **Não houve vermelho
fabricado**: escrever uma expectativa errada para ver o teste falhar não
provaria nada sobre a coerência por perfil. Fica registrado como
caracterização que o 4c já satisfazia — desvio honesto da coluna "vermelho
antes" do §9.

O que substitui o vermelho são **mutações no perfil de verdade**, cada uma
revertida com `git checkout`:

| mutação | reprovou |
|---|---|
| Approach com margem 0 | Approach "não é o footprint" (2) |
| Stop com margens 0 | Stop "não é o footprint" (2) |
| Stop 1 cm para dentro atrás | Stop "contém o footprint" (2) |
| Approach 5 mm para dentro | Approach "contém" e "não é" (4) |
| robô 2: Stop 1 cm maior na frente | robô 2, "footprint é o Stop" (2) |

Detecta perda de margem, perda de contenção e regressão da regra 032. Os
auxiliares geométricos têm testes próprios (quina vazando 1 mm, externo não
convexo, CW × CCW, mesmos pontos em outro ciclo).

**Achado que justifica a regra por perfil:** no robô 2 o `PolygonApproach` é o
corpo + 3 cm (frente 0,2465) e **não contém** o footprint (frente 0,35). Uma
regra única de contenção reprovaria o robô 2.

Revisão do dono: aceitar a ordem inversa dos vértices em `_mesmo_poligono`
(CW e CCW são o mesmo polígono) e corrigir D205/D209/D400 no docstring de
`_contem`; `ament_flake8` limpo. Suíte **1029**.

## 2026-09-22 (dev, sem robô) — ETAPA 4, PASSO 4: O PERFIL DO ROBÔ 3, MONTADO E AINDA RECUSADO

O código e os testes do passo 4 vieram escritos da sessão anterior, sem
commit e sem registro — **o vermelho de cada teste não ficou registrado**,
como no passo 3. O dono revisou o diff e aprovou as margens (D2/D3) com uma
correção: o `perfil.py` passou a importar YAML em produção, e o
`robot_motion/package.xml` não declarava `python3-yaml` (funcionava por
dependência transitiva do ambiente). Entrou no 4c. Decisão **053**; status da
**052** atualizado (tem consumidor agora).

Três commits, cada um com a suíte rodada **só com ele** (resto guardado com
`git stash --keep-index`; o 4b exigiu montar à mão a versão intermediária do
`perfil.py`):

- **4a `ca973c9`** — `raio_varrido_pivo: 0.3125` no artefato da 052: as bobas
  mandam (0,31249, arredondado para fora); o corpo rígido fica em 0,2760, e a
  quina do footprint (0,348) é área vazia, não robô. Teste contra o URDF.
  Suíte **979**.
- **4b `7af0ce1`** — `aplica_reescritas`: troca só folha que existe, por
  caminho completo; invalida reprova o lote sem efeito parcial. Suíte **991**.
- **4c `d75b65f`** — ramo `3` do `perfil.py` + `perfil_robo3.yaml`: (b) só por
  referência ao artefato, (c) em chaves próprias com classe/origem/etapa que
  fecha, partição fechada das bases (`herdados_provisorios` e
  `independentes_do_robo`). A pilha reprova também `collision_monitor_rewrites`
  não aplicadas e segue recusando `robo:=3`. Suíte **1014**.

**Build:** `colcon build --packages-select robot_motion robot_base`; o
`perfil_robo3.yaml` e o `raio_varrido_pivo` chegam ao `install/`, e o perfil do
robô 3 montado de lá (via `ament_index`) dá os números da revisão: Approach
x +0,1125/−0,3213 y ±0,220; Stop x +0,2155/−0,3413 y ±0,240; `re_largura`
0,480; recuo 0,2913; avanço 0,0825; pivô 0,3325.

**O que isto NÃO prova:** que o Nav2 aceita o footprint e o padding reescritos
— nenhum costmap do robô 3 roda nesta etapa. Fica para a etapa 6
(`ros2 param get` vivo). E nada do físico: as margens são herdadas do robô 2
até a etapa 8.

## 2026-09-21 (dev + Gazebo, sem robô) — ETAPA 4, PASSO 3: O ROBÔ 2 PASSA PELO PERFIL, ZERO DIFERENÇA

**`5659dd2`.** `robot_motion/perfil.py` (`parametros(2, share)`, puro, sem
ROS; `RoboSemPerfil` para qualquer outro) e a pilha montando o robô 2 por ele,
estático: `nav2` e `collision_monitor` saem do perfil; `nav2_rewrites` não
vazio derruba a subida (a pilha ainda não as aplica — seria costmap lendo o
arquivo sem a reescrita, em silêncio); a sobreposição do `path_follower` só
entra se existir. Argumento novo `robo` (default `"2"`) e `_recusa_robo`
antes de qualquer ação: texto exato, sem aparar nem converter (`" 2"`, `"02"`,
`"2.0"` recusam). Testes: `test_perfil.py` (inclui o
`test_perfil_robo2_identico_a_linha_de_base` do §9) e `test_pilha_robo.py`
(launch real num `LaunchContext`: ordem da recusa, perfil consumido de
verdade, lista do `path_follower` intacta). Suíte **978** (948 + 30). O
código foi escrito na sessão anterior; o vermelho não ficou registrado lá.

⚠️ **Antecipação em relação ao plano, registrada:** a mensagem própria e o
teste de recusa do `robo:=3` estavam no **passo 4** da tabela do §9
(`test_pilha_recusa_robo3_ate_a_etapa6`, `PLANO_ETAPA4_ROBO3.md:278`) e
entraram aqui. Motivo: o argumento `robo` nasce neste passo, e nascer aberto
(aceitando "3" sem dizer nada) seria pior do que já nascer fechado. O passo 4
fica com o perfil do robô 3; a recusa da pilha já está pronta e testada.

**Tropeço de ambiente, não de código:** a suíte rodada sem carregar o
`install/setup.bash` deste repo falhou no `test_import_do_fonte` — o shell
deste PC vem com o overlay do repo do robô 1 no `AMENT_PREFIX_PATH`. Com o
overlay certo, verde. Reproduzido também pelo revisor.

**Build + trava do §8:** `colcon build --packages-select robot_motion`; a
extração dos argumentos contra `argumentos_launch.yaml` (sem regerar) difere
só em `robo: '2'` na pilha.

**Gazebo (dono rodou o wrapper), commit `5659dd2`:** APROVADO, 30/30, 25
dumps, nenhum vazio, os seis ilegíveis conhecidos e nenhum outro. Contra a v2,
**sem permissão**: normalizado sem diferença, grafo idêntico, e até o dump
bruto e o `ilegiveis.yaml` idênticos. Conferido por mim a partir da pasta e
revisado pelo revisor. As duas anotações do console (shader do RViz; `kill -9`
no `ros2 launch` e no `ros2 bag`) são as mesmas da v2.
`docs/dados/2026-09-21-passo3-robo2/`. Bag de 417 MB em
`~/logs_robo2/corrida_2026-09-21_144632`, sem uso — pode ir para a lixeira.

⬜ Próximo: **passo 4** — `perfil_robo3.yaml` e o ramo do robô 3 no
`perfil.py` (footprint = artefato da 052 sem vértice redigitado, padding
declarado, valores próprios do §5); a pilha continua recusando `robo:=3`.

## 2026-09-21 (dev + Gazebo, sem robô) — BASELINE v2: A RÉGUA ENXERGA O REFLEXO

Captura 1 (commit `146216a`) **reprovou**, como o desenho mandava: quatro
ilegíveis inesperados do `/controller_manager` (`fallback_controllers` e
`node_options_args` dos dois controladores). O dono confirmou na pilha viva;
eu reli só em leitura e versionei a saída — 48 nomes, **0 valores no lote**.
Isso fecha a hipótese que estava aberta: foi o mesmo tudo-ou-nada que zerou o
dump dele na baseline original. Cadastrados em `52bbffc`, com a pilha ainda de
pé; simulados contra a captura 1 antes do commit (0 inesperados, 0 sem uso).

Captura 2, mesma pilha: **APROVADA** — 25 dumps, nenhum vazio, seis ilegíveis
todos cadastrados. Continuidade, conferida por mim e versionada como script:
os 23 nós antigos idênticos ao passo 2 (normalizado e bruto); contra a
original, só a permissão do passo 2; os dois nós novos com conteúdo, polígonos
iguais ao YAML e `git diff` vazio das fontes deles desde a baseline original.
`docs/dados/2026-09-21-baseline-v2-robo2/`.

Anotado para depois, fora do caminho: no desligamento o `ros2 launch` e o
`ros2 bag` precisaram de `kill -9` do wrapper.

⬜ Próximo: **passo 3** (`perfil.py`), contra a v2 e **sem permissão** — o
`avanco_para_choque` já está nela.

## 2026-09-21 (dev, sem robô) — ILEGÍVEIS CONHECIDOS: EXCEÇÃO EXATA, E EXCEÇÃO SEM USO REPROVA

Decisão do dono sobre os dois `Polygon*.max_points` do Nav2: lista versionada
`ilegiveis_permitidos` no arquivo de esperados, por nó + parâmetro EXATOS, cada
um com `origem`. Ilegível fora da lista reprova; exceção cadastrada que não
aparece (ficou legível ou sumiu) TAMBÉM reprova — eu tinha proposto só aviso.
O `ilegiveis.yaml` segue registrando tudo, e o resumo separa permitidos
observados, inesperados e exceções sem uso. O `/controller_manager` não entra
por precaução: primeiro a captura mostra o que ele não lê.

A `origem` aponta para evidência versionada: refiz a reprodução isolada como
script (`docs/dados/2026-09-21-collision-monitor-ilegiveis/reproduz.sh`) e
guardei a saída — CLI com dump `{}`, lote com 55 nomes e 0 valores, e cada
`max_points` sozinho voltando 0 valores.

**Tropeços:** o script abortou na primeira vez por `set -u` (o `setup.bash` do
ROS usa variável não definida). E uma armadilha do YAML 1.1: a chave `no:` sem
aspas vira o booleano `False` — os testes não pegaram porque o `safe_dump` põe
as aspas sozinho, e o validador quebrava com `TypeError`. Agora a chave vai
entre aspas no arquivo, e o validador recusa chave não-texto dizendo isso
(teste em YAML escrito à mão; o vermelho dele foi o próprio arquivo real).

Testes vermelhos antes: igual ao permitido aprova e registra; inesperado
reprova; exceção sem uso reprova (pura e de ponta a ponta, com parâmetro que
ficou legível); duplicada, nó fora de `nos`/só de grafo e formatos inválidos
reprovam. 5 mutações mordem, inclusive casar por prefixo. Suíte **948**.

## 2026-09-21 (dev, sem robô) — A RÉGUA TINHA UM FURO: DOIS DUMPS VAZIOS NA BASELINE

Achado lendo a baseline para a proposta do passo 3: `/collision_monitor` e
`/controller_manager` com **zero** parâmetros — nem `use_sim_time`. Os "25
dumps" aprovados incluíam dois vazios, e os polígonos Stop/Approach, que o §1
manda manter "como estão", nunca estiveram na régua.

**Causa, reproduzida sem Gazebo** (`collision_monitor` sozinho, domínio
isolado, `configure` + `activate` à mão): ativo, ele LISTA 55 parâmetros, mas
`PolygonApproach.max_points` e `PolygonStop.max_points` não são legíveis. O
`get_parameters` do rclcpp é tudo-ou-nada: um nome que falha zera o lote. A
captura fazia `zip(55 nomes, 0 valores)` → dump `{}` sem erro. O `ros2 param
dump` tem o MESMO defeito (`ros__parameters: {}`): a ferramenta copiou o CLI
fielmente, bug incluído. Inativo, com 5 parâmetros, tudo funcionava — o
defeito só aparece com o nó configurado. O `controller_manager` (dentro do
Gazebo) é quase certamente o mesmo mecanismo; não confirmado ainda.

**Conserto (critérios do dono):** qualquer contagem diferente da pedida — não
só lote vazio — leva à leitura nome a nome; cada leitura tem de dar exatamente
um valor; `PARAMETER_NOT_SET` é ilegível; os legíveis continuam gravados; os
ilegíveis ficam por nó e nome em `ilegiveis.yaml` (SEMPRE gravado — `{}` é
afirmação) e no `resumo.yaml`, e **reprovam**; dump vazio de nó da lista
reprova. Eu tinha proposto que ilegível não reprovasse; o dono decidiu que
reprova.

Testes vermelhos antes: 10 puros (`resolve_lote`, motivos) e os 3 pedidos, de
ponta a ponta, contra um nó fingido com os seis serviços de parâmetro escritos à
mão imitando o tudo-ou-nada — o do "lote que falha mas responde um a um"
REPRODUZIU o dump `{}` da baseline. Tropeço meu: a primeira versão do nó
fingido não tinha a classe (uma substituição procurou uma linha duplicada que
só existia na minha leitura sobreposta do arquivo) e dois testes falharam pelo
motivo errado — pego olhando o `nos_visiveis: 0`, corrigido antes da
implementação. 5 mutações mordem. Contra o `collision_monitor` real: 53
legíveis, os 2 `max_points` ilegíveis, polígonos lidos. Suíte **931**.

⚠️ **Consequência para a baseline v2:** com "ilegível reprova", o
`collision_monitor` do Nav2 vai reprovar SEMPRE por `max_points` — defeito
dele, não nosso. Decisão pendente do dono antes do Gazebo.

A baseline original ganhou nota do furo no README e fica como está.

## 2026-09-21 (dev, sem robô) — OS TESTES PASSAM A IMPORTAR O FONTE (infra, antes do passo 3)

Achado do passo 2: com o overlay carregado, os testes importavam a cópia do
`install/`. Decisão do dono: corrigir antes do passo 3, em commit próprio, sem
mexer em `AMENT_PREFIX_PATH` nem no `share/`.

**Vermelho 1, isolado** (`pytest test_import_do_fonte.py`, overlay carregado):
`robot_base`, `robot_motion` e `robot_nav` vinham de
`install/<pkg>/lib/python3.12/site-packages/`; `robot_planning`, de `build/`.
Na primeira versão o teste usava `realpath` e APROVAVA o `robot_planning`: o
`build/` dele é `--symlink-install` de 28-07 apontando para o fonte — passaria
por estado de build desta máquina. Passou a exigir o `__file__` literal: 4/4
vermelhos; a guarda "o `share/` continua no install/" verde.

**O `conftest.py` com os quatro fontes na frente do `sys.path` deixou o teste
isolado verde — e a suíte inteira seguiu vermelha (vermelho 2: 3 falhas, 915
passed).** Rastreado com uma sonda no `sys.path`: o pytest DESCE em `install/`
(o padrão dele só pula `build/`), acha os `__init__.py` dos pacotes instalados,
o plugin `launch_testing` do ROS os importa via `import_path`, e esse põe o
site-packages do install/ na posição 0 — por cima do conftest. Sozinho o teste
nunca fazia a coleta descer lá. Correção no mesmo `conftest.py`:
`collect_ignore_glob` para `install`, `log`, `build` e o lixo de colcon dentro
de pacotes. Nenhum teste some: a coleta segue 918.

**Verde:** suíte **918** (913 + 5). E a prova de uso: voltar o `vao_frente()`
para o recuo **só no fonte, sem build**, agora reprova o
`test_o_vao_da_frente_usa_o_avanco` — antes passaria verde, testando o
install/. Gazebo, console scripts e a trava dos launches continuam no install/,
recompilado pelos wrappers.

## 2026-09-21 (dev + Gazebo, sem robô) — ETAPA 4, PASSO 2: O VÃO DA FRENTE MEDE DA FRENTE

**`86ca1ed`.** `avanco_para_choque` (0,28) no `path_follower`; o `vao_frente()`
passa a usá-lo em vez do recuo de TRÁS. Troca de um argumento só — conferido
lendo `vao_frente()` e `vao_no_corredor_frontal` antes. Testes vermelhos antes:
vão frontal dava 0,720 (= 1,0 − recuo) com avanço 0,10, e o parâmetro não
existia; mais uma guarda de que o `vao_traseiro()` continua no recuo. Suíte 913.

**Tropeços:** a guarda chamava `vao_atras`, que não existe, e falhou pelo motivo
errado — corrigido para `vao_traseiro` antes da mudança. E um **achado que já
existia**: com o overlay carregado, os testes do `robot_motion` importam a cópia
do `install/`, não o fonte. O teste seguiu vermelho com o código já certo até
eu recompilar. "Suíte verde" em código Python só vale depois do build — a
correção fica para um passo próprio, não misturada com este.

**Gazebo (dono olhando), commit `86ca1ed`:** APROVADO, 30/30, 25 dumps. Contra a
baseline do passo 0, com a permissão versionada ANTES da captura: uma única
diferença, a permitida (`entrou`, 0,28); grafo idêntico; dump bruto com uma
linha nova e mais nada. Conferido por mim a partir da pasta.
`docs/dados/2026-09-21-passo2-robo2/`. Bag de 285 MB para a lixeira pelo dono.

⬜ Próximo: **passo 3** — `perfil.py` e a pilha montando o robô 2 por ele
(`robo:=2` padrão); vermelho `test_perfil_robo2_identico_a_linha_de_base`.

## 2026-09-21 (dev + Gazebo, sem robô) — ETAPA 4, PASSO 1: O PADDING ESCRITO, ZERO DIFERENÇA

**Achado antes de escrever o YAML:** o padding vivo da baseline,
`0.009999999776482582`, é exatamente `float32(0.01)` — o Nav2 declara `0.01f`
e guarda num `float footprint_padding_` (`costmap_2d_ros.hpp:397`). A nuance
do dono no passo 0 (declarar o valor que vigora dá zero diferença) vale **só
com o número vivo inteiro**: escrito como `0.01`, o parâmetro vivo mudaria em
~2e-10 e a comparação acusaria `mudou`, embora o float32 que o Nav2 usa fosse o
mesmo. Propus (A) `0.01` com permissão exata; o dono escolheu (B): declarar o
valor vivo inteiro e fechar o passo **sem nenhuma permissão**.

**`f6e661f`.** Teste vermelho antes (`test_footprint_padding_declarado`, chave
ausente nos dois costmaps). Ele exige igualdade exata com a baseline
VERSIONADA (lê o YAML de `docs/dados/`) e float32 igual ao de hoje; mutação com
`0.01` morde. Suíte **910**.

**Gazebo (dono olhando), captura no commit `f6e661f`:** APROVADO, 30/30 nós, 25
dumps. Contra a baseline: zero diferença normalizada, sem permissão; grafo
normalizado idêntico; e o dump **bruto** idêntico byte a byte — a
normalização não precisou esconder nada. Conferi eu mesmo a partir da pasta, não
só pelo relato. Único erro no launch: o shader GLSL do RViz de sempre. Bag de
288 MB para a lixeira pelo dono. `docs/dados/2026-09-21-passo1-robo2/`.

⬜ Próximo: **passo 2** — `avanco_para_choque` (0,28) no `path_follower`, teste
vermelho antes; é a primeira diferença PERMITIDA do §1.

## 2026-09-21 (dev, sem robô) — ETAPA 4, PASSO 0: LINHA DE BASE DO ROBÔ 2

Branch `etapa4-perfis`. Três commits, só ferramenta, nenhum arquivo de produção:
`ceb18c2` normalizador/comparador, `115c75c` captura, `19d946d` trava dos
argumentos + nós esperados + `bin/linha-de-base-robo2`. Suíte da raiz 856 → 901.

**Garantias pedidas pelo dono na revisão do desenho**, e onde ficaram: bool
nunca igual a número (em Python `True == 1`); `qos_overrides.*` excluído pela
chave COMPLETA, lista versionada e travada por teste; permissão por caminho
exato, com tipo e valor, e permissão sem uso avisada; leitura pelos mesmos
serviços do `ros2 param dump` (`list_parameters` recursivo — conferido que o
`depth=None` do cliente deixa o 0 da mensagem — e `get_parameters`); nome
duplicado reprova ANTES de consultar estado ou parâmetro; grafo igual em N
consultas seguidas; nó da ferramenta oculto; `footprint_padding` dos dois
costmaps no normalizado e no resumo. Nuance dele, registrada para o passo 1:
declarar o padding com o valor vivo deve dar **zero** diferença no dump (o Nav2
já declara o padrão) — a mudança é no fonte; diferença viva de valor reprova.

**Desvio de processo (registrado a pedido do dono):** no 0b escrevi a captura
ANTES dos testes, invertendo a ordem do 0a. Compensado com 7 mutações; duas
sobreviveram de primeira — consultar estado com nome duplicado e ignorar a
estabilidade no laço — e mostraram buracos nos testes, não na ferramenta.
Reforçados, as 7 mordem. O dono não viu motivo para refazer o commit.

**Nós esperados — o que eu queria fazer e não fiz.** Propus aceitar nomes
variáveis por prefixo (`/launch_ros_`). O dono barrou: o `launch_ros_<pid>` só
nasce sob demanda e a pilha não usa as ações que o criam — não há evidência de
que apareça; e prefixo, além de aceitar nome indevido, faria o PID diferente
acusar nó removido + nó novo na comparação seguinte. Ficou a lista EXATA
prevista pelo código (25 nós, com `/rosbag2_recorder`, nome estável no Jazzy);
se nome variável aparecer mesmo, entra com expressão ancorada, cardinalidade e
alias estável, em commit próprio.

**Tropeços meus, pegos antes do commit:**
- a primeira mutação do 0a não mordeu por ser a mutação errada (sem o ramo
  `bool`, o valor cai no genérico que já rotula pelo tipo);
- quase usei nome de LOGGER como prova de nó: o log do smoke de 18-09 tem
  `resource_manager`, `rclcpp`, `kdl_parser` como loggers, e nenhum é nó. O
  `/gz_ros_control` entrou pela string no `.so` do plugin, anotado como previsão;
- a conferência do `install/` com `find` pegava lixo de colcon dentro de
  `robot_base/description/` — passou a espelhar o `data_files` do `setup.py`
  sobre `git ls-files`.

**Achado:** o `install/` do `robot_motion` neste PC é de **12-08**
(`joystick.launch.py`, `teleop_xbox.yaml` nem estão lá; falta também o
`geometria_robo3.yaml` da 052). Uma linha de base sem build teria medido config
velha. O wrapper recompila e confere antes de subir.

**Sessão de Gazebo, com o dono olhando.** Uma primeira subida foi interrompida
por um mal-entendido operacional antes de terminar a captura e não virou dado.
Na subida seguinte, a ferramenta fez o que devia: reprovou porque os 25 nós
previstos estavam presentes, mas havia cinco auxiliares internos não previstos
e sem serviços de parâmetros. O fixo
`/bt_navigator_navigate_to_pose_rclcpp_node` vem do `BtActionServer`; os quatro
`/transform_listener_impl_<hex>` vêm do BT Navigator, Collision Monitor e dos
dois `Costmap2DROS`. O achado ficou preservado antes da correção.

O commit `feb064a` separou nós com parâmetros de nós somente de grafo. Para os
listeners, aceita apenas `^/transform_listener_impl_[0-9a-f]+$`, exatamente
quatro ocorrências, e grava alias estável; nome parecido ou cardinalidade
diferente reprova. Sete testes novos cobrem a regra, inclusive ponta a ponta
contra nós sem serviços. Suíte da raiz: **908/908**.

**Captura final aprovada:** 30/30 nós visíveis, 25 dumps, todos os lifecycle em
`active`, nós comuns respondendo, nenhum duplicado/faltando/sobrando. O
`footprint_padding` vivo é **`0.009999999776482582` nos dois costmaps**. A única
linha de erro do launch é o shader GLSL do RViz; o RViz e a pilha permaneceram
de pé e a captura não foi afetada. Evidência completa, inclusive a primeira
reprovação, em `docs/dados/2026-09-21-baseline-robo2/`.

⬜ Próximo: **passo 1** — declarar esse padding no `nav2.yaml`, começando pelo
teste vermelho, e comparar o dump vivo contra esta linha de base.

## 2026-09-18 (dev, sem robô) — PLANO DA ETAPA 4, REVISADO E APROVADO (sem código)

`docs/PLANO_ETAPA4_ROBO3.md`. Lendo o código antes de planejar apareceram três
coisas que mudaram o desenho: o `vao_frente()` usa o recuo TRASEIRO como avanço
do para-choque dianteiro (simetria que o robô 3 não tem — 0,2913 contra 0,0825);
o robô 2 não declara `footprint_padding` (roda com o padrão do Nav2, que
ninguém escreveu); e a trava footprint = reflexo da decisão 032 é proibida para
o robô 3 pela 052.

Uma incoerência minha pega antes de mostrar: eu prometia medir o footprint vivo
dos costmaps do robô 3, mas com a pilha recusando `robo:=3` nenhum deles roda na
etapa 4. Ficou: YAML reescrito testado na 4, valor vivo na 6 (escrito lá).

A revisão do dono **não aprovou de primeira**. Cinco correções e três ajustes:
eram DUAS diferenças permitidas no robô 2, não uma; teste estático não resolve
condição/include/`OpaqueFunction`, então a prova é o grafo em execução; diff de
parâmetros semântico e normalizado, por lista de nós, com tudo ativo; nada de
`reset --hard` na reversão; `PolygonApproach` e `PolygonStop` são funções de
segurança diferentes e o meu "idem" as misturava. Ele fixou os valores da D3 e
achou um defeito real no `sobe-robo3`: ele **mata** `joy_node`/`twist_mux` por
nome genérico e derrubaria o robô 2 ou o simulador — virou o passo 6a. E faltava
a dependência `robot_nav → robot_base`. Aprovado para começar pelo passo 0.

## 2026-09-18 (dev, sem robô) — ETAPA 3, PEDAÇO 2: A VARREDURA DAS BOBAS E O FOOTPRINT CANÔNICO (decisão 052)

- Conta: raio varrido 0,04272 m, traseira varrida −0,29122, lateral das bobas
  0,14772 < 0,190 (o pneu manda na largura). Conferida pelo dono à parte.
- Eu propus travar o polígono só no teste e na decisão até a etapa 4. **O dono
  condicionou**: polígono que só existe no teste é teste sem consumidor. Virou
  artefato: `robot_base/config/geometria_robo3.yaml`, footprint **sem padding**,
  declarado como caixa delimitadora (área vazia nas quinas ≠ margem).
- Achado ao escrever: o −0,2912 que estava na mesa **não cobre** −0,29122.
  Arredondado para fora: −0,2913.
- 3 testes novos (varredura, cobertura, sem folga) → **28/28**. Mutação à mão
  para ver que mordem: −0,2912, 5 cm embutidos e traseira na caixa, cada um
  reprovado; original restaurado.
- **Fronteira do plano mudada formalmente**: a etapa 3 fecha com URDF girado +
  artefato; o consumo pelo Nav2, o `footprint_padding` explícito, os outros
  consumidores de geometria e o `robot_state_publisher` passam para a etapa 4,
  escritos na linha dela. O dono tinha avisado: não dá para fechar a 3 dizendo
  que o consumidor dela nasce depois.
- Erro meu pego na revisão da própria decisão: escrevi "~1 cm²" de área vazia;
  é ~105 cm² na faixa de trás. Corrigido antes do commit.

## 2026-09-18 (dev, sem robô) — ETAPA 3, PEDAÇO 1: O URDF DO ROBÔ 3 GIRA 180° (decisão 051)

- Proposta minha: girar só x e trail primeiro e usar o smoke como prova. **O
  dono recusou**, com razão: os itens 1–4 do §3 são acoplados, meia rotação é um
  modelo intermediário, e o smoke não comanda movimento — não vê lado trocado
  nem yaw errado, nem footprint.
- Testes primeiro: 4 vermelhos / 21 verdes. Na revisão o dono pediu mais três
  coisas, todas aplicadas: o trail testado também na origem visual e inercial do
  garfo; o yaw 0 do Livox registrado como **convenção nova** (não consequência
  do giro); o teste de coerência renomeado para
  `test_urdf_girado_exige_frente_negativa_no_controle`, porque não observa roda
  física. Mais: comprimento e porta por `max x − min x`, verdes nos dois lados.
- Depois da transformação: `test_urdf_robo3.py` **25/25**; suíte da raiz
  **853 passed** com `--ignore=ESTAGIO-2026`. ⚠️ Sem esse ignore aparecem 2
  falhas de flake8/pep257 em `ESTAGIO-2026/`, que é pasta **local deste PC**,
  fora do git (`.gitignore:97`) — não é código do projeto.
- Valores renderizados conferidos: bobas em x −0,2485, caixa e Livox em −0,093,
  garfo e rodinha em +x (lado do eixo), yaw 0 explícito.
- Falta: o smoke do Gazebo com o dono olhando (só prova que continua subindo) e,
  separado, a envolvente varrida e os footprints.

### Smoke pós-giro, 15:52 — aprovado (`docs/dados/2026-09-18-robo3-smoke-gazebo-pos-giro/`)

Inspeção visual do dono correta; itens 1–5 PASSOU; controladores conferidos
`active` à mão pelo dono; 0 erros no launch; encerramento limpo. Prova só que a
cadeia continua subindo com o modelo girado — não a rotação.

**A causa do falso vermelho do item 6 apareceu** (achada pelo dono): o
`ros2 control` não existe neste PC — falta o `ros2controlcli`. Meu verificador
chamava o CLI, não olhava o código de retorno nem o stderr, e escrevia
"ausente". O dono tinha dito de manhã para não arrumar; agora pediu. Conserto:
o verificador chama direto o serviço `/controller_manager/list_controllers`
(`controller_manager_msgs`, instalado). Conferido contra um controller_manager
fingido: sem serviço → INCONCLUSIVO, dois active → PASSOU, um inactive e um
ausente → FALHOU. Falta vê-lo verde no próximo smoke real.

## 2026-09-18 (dev, sem robô) — SMOKE TEST DO ROBÔ 3 NO GAZEBO: A CADEIA SOBE INTEIRA

Pedido do dono: preparar o smoke test da trilha §8-B (`PLANO_NAV2_ROBO3.md`),
com saída no terminal e em arquivo, encerramento limpo, checklist objetivo e o
aviso explícito do que ele não valida. Roda quando ele puder olhar a tela.

- **Tropeço meu na abertura da sessão:** li o repo sem `git fetch` e resumi o
  projeto como parado em 14-09, com 53 commits (15 a 17-09) no GitHub. O dono
  corrigiu. Consequência que importa aqui: o `install/` deste PC era de
  **09-09** e diferia do fonte no URDF e no YAML do robô 3 — o build de 17-09
  foi em outra máquina. Por isso o script recompila e confere com `cmp` antes
  de subir, e para se diferir.
- `bin/smoke-gazebo-robo3` + `tools/smoke_gazebo_robo3.py`. Seis itens em
  PASSOU / FALHOU / INCONCLUSIVO: modelo assentado, `/livox/pontos`, `/scan`,
  `/Odometry`, TF, controladores. Taxas pelo carimbo (tempo de simulação),
  com o fator de tempo real anotado. Saída em `~/sim_robo3/smoke_<data>/`.
- **Mundo: `pista_obstaculos`, não o padrão `pista_livre`.** A livre não tem
  parede, então o `/scan` sairia todo `inf` e o item 3 não provaria nada.
  Pose (2,0 · 5,0), a mesma da pilha nessa pista.
- O item "assentado" tem um INCONCLUSIVO de propósito: não sei se o
  `OdometryPublisher` dá z absoluto ou relativo ao spawn. Se vier −0,05, a
  palavra é do olho do dono, não do número.
- Classificação conferida com mensagens fingidas (casos bons e ruins de cada
  item). **O Gazebo não subiu** — regra da casa, só com o dono olhando.
- 🔴 **O que o teste não valida**, e está impresso no próprio console:
  geometria, massas, curvatura, zona morta, dinâmica da placa e o
  `frente:=-1.0` — este nem está na cadeia do sim (é do `cmd_vel_to_wheels`;
  o sim usa o `diff_drive_controller`).

### Rodado às 14:51, com o dono olhando — 6/6 (dados em `docs/dados/2026-09-18-robo3-smoke-gazebo/`)

| item | resultado |
|---|---|
| assentado | z 0,0000, roll/pitch 0,00°, deriva 0 mm; dono: *"parecia estar ótimo"* |
| `/livox/pontos` | 9,5 Hz, 20 000 pontos, `livox_frame` |
| `/scan` | 9,6 Hz, 359/360 feixes finitos |
| `/Odometry` | 50,0 Hz, odom → base_link |
| TF | as quatro presentes |
| controladores | ativos pelo `launch.log` (linhas 69 e 82) |

Fator de tempo real 1,00. Derrubou limpo com SIGINT, sem `kill -9`.

**Dois defeitos meus no instrumento, não no simulador**, deixados como estão
por decisão do dono ("não precisa arrumar esse teste"):

- o item 6 do verificador disse "ausente" para os dois controladores com os
  dois ativos — falso negativo. O próprio item 5 desmente (TF das rodas exige
  `/joint_states`). A causa não se sabe: a saída crua do
  `ros2 control list_controllers` não foi guardada.
- o resumo disse "0 erros" no `launch.log`, mas ao derrubar a `placa_simulada`
  morre com `RCLError: rcl_shutdown already called` (`placa_simulada.py:446`,
  `rclpy.shutdown()` depois do sinal). É do encerramento, depois da janela; o
  grep rodou antes do ENTER e não viu. Cosmético, anotado.

➡️ Isto fecha só o que a trilha §8-B promete: **a cadeia de software do robô 3
sobe no Gazebo**. Nenhuma etapa física muda de estado.

## 2026-09-17 (dev, robô desligado) — ROBÔ 2: A POSE SÓ ANDA COM AS RODAS

Pedido do dono: a pose pula no mapa com o robô parado. Decisão 050.

- Eu afirmei que o robô 1 tinha essa trava **antes de ler**; ele perguntou "é
  assim que o 1 faz??" e não era: no robô 1 o efeito vem do odom de encoder, não
  de um gate. Fracasso de método, registrado.
- Feito: `recovery_alpha` zerados (cópia do robô 1) e `congela_parado` no
  `tf_odom`, ligado só pela `base.launch.py`. 4 testes novos verdes; a suíte
  tem as mesmas 2 falhas de antes (`test_scan_2d`, `test_plano_suavizado`).
- 🔴 Não testado no robô.

### 🔴 A trava levou revisão no mesmo dia, e tinha um defeito que mentia a pose

Revisão cruzada pegou quatro coisas, todas conferidas no código antes de mexer.
A grave é a primeira, e não é estilo — é comportamento:

**1. Uma roda falava pela outra.** O `CongelaParado` guardava **um** `t_roda`
para as duas, e o `tf_odom` chamava `rodas(agora, *self.v)` a cada mensagem de
qualquer lado, passando o valor em **cache** do outro — que nascia `0,0`. Então
bastava o stream de uma roda nunca chegar (driver caído, cabo solto) para a
outra, publicando zero, **manter a trava armada contra uma leitura que nunca
existiu**. A TF congelava com o robô possivelmente andando, empurrado pela roda
que não reporta, e a pose mentia **sem sintoma** — a pior forma de defeito neste
projeto. Agora cada roda tem valor e instante próprios; só congela com as duas
vistas e as duas frescas. Dois testes novos: "roda que nunca publicou" e
"leitura velha de UMA roda". Os 4 testes originais ficaram **intactos** — a
assinatura `rodas()` foi preservada de propósito, porque mudar API e depois
ajustar teste para passar é apagar regressão.

**2. `recovery_alpha_*` devolvidos** a 0,001/0,1. Zerá-los é mudança
independente da trava; juntas, um ensaio ruim não diz qual das duas foi. E
**nenhum teste no repo afirma esses valores** — entraram sem cobertura.

**3. `std_msgs` faltando** no `package.xml` do `robot_base`, com o `tf_odom`
importando `Float64`. Funcionava de carona no ambiente; quebraria em build limpo.

**4. O tutorial mandava manter o robô ligado** durante `--mata`, build e
subida. Contradiz o registro da placa **girar as rodas sozinha** com a MEGA
mandando zero, e os 0,52 s de retenção da decisão 020 — e desta vez com um nó
novo assumindo o `odom → base_link`. Agora: placa desligada (ou rodas
suspensas) nos passos 1 a 3.

**E um quinto, que eu acrescentei:** a `base.launch.py` ligava a trava por
**padrão**. Qualquer `reset --hard origin/main` + `sobe-robo` no NUC a
implantaria sozinho — código não validado entrando em produção por inércia, que
é o pior estado intermediário possível. Virou argumento, padrão `false`.

⚠️ **DOIS erros meus no caminho, e são o MESMO erro — escrever instrução sem
conferir se ela roda:**

1. Ao tornar o launch opt-in usei `LaunchConfiguration` num arquivo que não o
   importava e sem declarar o argumento. `py_compile` **não pega** (é lookup em
   tempo de execução dentro da função); só apareceu ao carregar o módulo e
   chamar `generate_launch_description()` de verdade.
2. Tornar a trava opt-in quebrou o passo 3 do tutorial, que mandava
   `bash bin/sobe-robo` e depois conferir a linha no log — que **nunca mais ia
   aparecer**. Escrevi `congela=on` na correção... sem ver que o `case "$1"` do
   script recusava qualquer coisa fora de `slam|nav2|mapa=|--mapa` e sairia com
   "modo desconhecido". A instrução corrigida também não funcionava.

Consertado: o `sobe-robo` ganhou `congela=on`, parseado **antes** do `case` e
fora dele (idioma do `sobe-robo3`), para compor com `mapa=<nome>` em vez de
virar um modo. E foi **provado** extraindo o bloco do arquivo real e rodando 7
conjuntos de argumentos, inclusive o vazio — não a cópia redigitada, que é onde
esse tipo de teste mente.

**A lição, que vale para o artigo:** compilar não é conferir. Launch se
instancia, script se executa com os argumentos de verdade. Duas vezes na mesma
hora, as duas pegas só porque rodei — nenhuma apareceu na leitura.

⚠️ **E à tarde eu caí na armadilha que documentei de manhã, nesta mesma
entrada.** Rodei `pytest` passando caminhos como alvo, vi
`test_o_raio_de_chegada_do_nav2_bate_com_o_do_seguidor` falhar importando de
**`build/robot_motion/...`** (a árvore velha do colcon), e por um momento achei
que tinha quebrado alguma coisa. Da raiz, sem argumento, o mesmo teste passa:
`1 passed, 855 deselected`.

Documentar a armadilha **não** impede de cair nela — o que impede é a regra
virar hábito de invocação. Fica reforçado: **a suíte deste repo se roda da raiz,
sem passar caminho.** Quando o resultado for estranho, a primeira suspeita é a
invocação, não a mudança.

### 🔴 O TESTE DE REGRESSÃO ESCONDIA O BUG QUE ELE DEVIA PEGAR

E o bug da trava precisou de **duas** voltas. A 1ª correção zerava o cronômetro
dentro de `congelado()` — e o teste que escrevi para ela **chamava `congelado()`
durante o apagão**. Era a própria chamada do teste que fazia a limpeza. Verde,
convincente, e o defeito intacto: bastava ninguém consultar a trava (roda de um
lado muda **e** LIO calado) para o primeiro pacote que voltasse congelar a TF
com o robô possivelmente andando.

Reproduzido antes de consertar, de novo. A correção certa mora no `_reavalia()`,
que roda **a cada mensagem de roda**: durante um apagão de um lado, o lado vivo
continua publicando e é ele quem derruba o cronômetro, sem depender do LIO. A
limpeza no `congelado()` ficou também, para o caso de **todas** as rodas
calarem — cinto e suspensório, cada um cobrindo o buraco do outro.

**A lição, e é a melhor do dia:** *um teste que exercita o caminho do conserto
pode esconder exatamente o defeito que ele deveria pegar.* O teste novo omite
deliberadamente qualquer chamada durante o apagão — é o silêncio que é o caso
adverso. Sempre que a correção e a verificação passarem pelo mesmo caminho,
desconfiar.

⚠️ Ficou ainda um exagero meu corrigido junto: eu tratei os 60 mm de largura da
roda como se tivessem "derrubado" os 58 de catálogo. Não derrubaram — as duas
leituras são "±", a meia-diferença carrega ~0,7 cm, e isso **engole** a distância
de 2 mm entre os dois valores. Fica 0,060 por ser deste robô e não de catálogo
genérico: **escolha declarada, não evidência.**

### ⏸️ Fim do dia — etapa 2 adiada, e eu contradisse a mim mesmo em seis horas

Decisão do dono: sem ensaio nem implantação em robô físico esta semana. Trabalho
no Gazebo, e a etapa 2 fica **adiada**, não concluída.

**O erro que mais me incomoda do dia inteiro** apareceu na revisão do protocolo
que eu tinha acabado de escrever. O discriminador que propus — "troque os canais
L/R e veja se o desvio segue o canal ou o sentido" — mandava inverter
`left_wheel_sign` e `right_wheel_sign` **juntos**.

Isso não troca canal nenhum. É **espelho**: inverte frente e giro. E quem diz
isso, em letras grandes, é o docstring do `cmd_vel_to_wheels.py` — *"Rotação ≠
reflexão. Ver decisão 049"* — que **eu escrevi nesta mesma sessão**, de manhã,
ao fechar a decisão 049. Seis horas depois construí um ensaio inteiro em cima do
oposto do que eu mesmo tinha documentado.

Não há swap L/R no nó. Trocar canal de verdade exige mexer nos conectores dos
motores ou um parâmetro novo que não existe — e eu **não** vou inventar código
sem pedido.

> ⚠️ **Corrigido adiante nesta mesma entrada:** o "parâmetro novo" não é só
> inexistente, **não funcionaria**. Na reta `L == R`, então `steer = 0` e trocar
> L↔R entrega o frame idêntico à placa — swap de software ali é no-op. Fica a
> frase original porque foi o que se pensou na hora. Até lá o ensaio mede curvatura por sentido (o que já vale), mas não
separa causa de lado de causa de sentido, e o protocolo diz isso agora.

Mais dois consertos da mesma revisão:

- **`A B A B` não contrabalança.** Nessa sequência A vem **sempre** antes de B,
  então a queda de bateria empurra todos os B para o fim e vira o "efeito de
  sentido" que se quer medir. Passou para blocos **ABBA/BAAB**.
- **"O robô 3 não tem Livox" estava errado como enunciado.** Ele **terá** — o
  Mid-360 vem emprestado do robô 2; o certo é *"ainda não montado, pose
  provisória"*. Corrigido no protocolo, no plano e no estado.

E um achado de infra que valia a sessão inteira: o **`install/` estava
desatualizado** em relação ao fonte nos três arquivos do robô 3. Qualquer
validação no Gazebo hoje teria testado o código de ontem, com a geometria velha
— e passaria, dando confiança falsa. Recompilado e conferido com `cmp`.

**O padrão do dia, e é o que vai para o artigo:** documentar não impede de
errar. Errei contra a minha própria documentação duas vezes (a armadilha de
invocação do pytest e agora o espelho × rotação), e as duas só apareceram porque
**outra pessoa leu**. Registro serve para a revisão ter onde se apoiar — não
para o autor se lembrar sozinho.

### 🔴 E o `swap_lr` que eu ia propor seria um NO-OP — por aritmética

A revisão seguinte matou até o conserto que eu tinha proposto para o
discriminador. Eu havia escrito que trocar canal exigiria "um parâmetro
`swap_lr` novo, que não existe". Existe coisa pior que não existir: **não
funcionaria.**

O `mega_bridge` não manda comando por roda para a placa. Ele manda o par do
firmware do hoverboard:

```
speed = (L + R) / 2
steer = (L − R) / 2
```

Numa **reta** os dois setpoints são iguais, `L == R`. Logo `steer = 0`, e trocar
L↔R dá `speed` igual e `steer = −0`: **o frame que chega na placa é idêntico**.
Um swap de software na reta é literalmente um no-op. Conferi no código antes de
aceitar — e fico feliz de não ter escrito o parâmetro "só para destravar o
ensaio": teria sido código novo, testado, versionado, e inútil.

> 🔴 **ERRADO, corrigido adiante nesta mesma entrada:** tinham olhado sim — em
> **14-09**, com os cabos já trocados e os números no `docs/dados/`. A frase
> abaixo fica como registro do meu erro, não como afirmação.

**O que entrou no lugar já existia e ninguém tinha olhado:**
`/hoverboard/wheel_velocities` publica **RPM por roda**, e o `bin/sobe-robo3`
**já grava**. Com os setpoints iguais na reta, o RPM separa:

- rodas girando **diferente** → assimetria na tração *ou na carga sobre ela*;
- rodas girando **igual** e o robô puxando → a causa está **fora** da tração.

⚠️ E não vende mais do que entrega: RPM menor pode ser **carga**, não canal
elétrico. Isolar canal de carga continua exigindo trocar os conectores dos
motores — ensaio físico, robô desligado para a troca. Está escrito assim.

Dois consertos menores da mesma leva: o `ABBA/BAAB` tinha chegado ao protocolo
mas **não** ao §7 do plano, que ainda dizia "alternada"; e o plano afirmava ao
mesmo tempo "nenhuma etapa começa sem a anterior fechada" e uma trilha de Gazebo
aberta com a etapa 2 adiada. Agora está declarado: **a trilha de simulação é
PARALELA e não fecha etapa física nenhuma.**

**O padrão que se repetiu três rodadas seguidas:** o resíduo estava **dentro do
documento que eu tinha acabado de consertar**. Consertar cria contradição nova
entre a parte corrigida e a que ficou — e é por isso que a varredura depois de
editar deixou de ser zelo e virou parte do trabalho.

### 🔴 "Ninguém tinha olhado" — e tinha, três dias antes, com os cabos trocados

Apresentei o RPM por roda como achado meu: *"já existia e ninguém tinha
olhado"*. **Mentira, sem intenção mas mentira.** Está medido e analisado desde
**14-09**, em `docs/dados/2026-09-14-robo3-gnd-xbox-reta/`:

| condição | FL × FR |
|---|---|
| no ar, +250 | L = R (**−0,1 %**) |
| no ar, −250 | L **+2,7 %** |
| **no chão, cabos JÁ TROCADOS na placa**, frente | **+9,8 %** (3/3 corridas) |
| no chão, ré | **−1,8 %** |

E o diário daquele dia já tinha o raciocínio: *"cabos trocados + frente" e
"antes + ré" movem o robô para o mesmo lado físico, cada motor girando para o
mesmo lado — e deram resultados diferentes.*

**Os conectores já foram trocados uma vez.** Eu escrevi um protocolo propondo
essa troca como se fosse passo inédito.

➡️ O que o dado de 14-09 realmente diz: **no ar os canais são simétricos, no
chão não**, já com os cabos trocados — aponta para algo **dependente do contato
com o solo**, não para desequilíbrio eletrônico puro. O que falta para fechar é
um **par controlado de RPM antes/depois** da troca; o "antes" daquele dia foi
observação a olho.

⚠️ E mais um exagero meu junto: escrevi que RPM iguais provariam "causa fora da
tração". Não provam. Provam só que o puxão **não veio de diferença de velocidade
angular medida nos eixos** — raio efetivo diferente, deformação do pneu,
escorregamento e carga desigual continuam todos possíveis.

**A lição, e é diferente das outras do dia:** as anteriores foram erros contra a
minha própria documentação **recente**. Esta foi contra dado que o projeto já
tinha, medido e escrito, e que eu não fui procurar antes de propor. Antes de
desenhar ensaio novo, **ler o que já foi medido** — este repo guarda tudo em
`docs/dados/` exatamente para isso.

### 🔴 E aí eu li o dado errado: comparação de duas variáveis ao mesmo tempo

Mal incorporei o RPM de 14-09 e tirei dele a conclusão *"no ar simétrico, no chão
não, logo depende do contato com o solo"*. **Não segue.** As duas condições
diferem em **duas** variáveis:

```
no ar    speed = ±250
no chão  dpad 0,30 m/s × escala 400 = ±120
```

A placa tem zona morta e resposta não linear — o salto de −0,1 % para +9,8 %
pode ser da **magnitude do comando**, não do solo. Confirmei a escala no
`teleop_xbox_robo3.yaml` (que já traz o comentário *"→ 120 unidades na placa"*)
e no CSV, onde `dpad_x` só assume ±0,3.

O enunciado certo, e é o que ficou nos três documentos: **os dados são
compatíveis com efeito de carga/contato, mas estão confundidos por comandos
diferentes.** Separar é barato — repetir no ar e no chão com o mesmo setpoint,
tensão e configuração, no mesmo dia do ensaio.

**E um segundo dataset que eu de novo não fui ver antes de propor:**
`docs/dados/2026-09-15-robo3-pivo-parcial/`. No pivô, **nos dois sentidos a roda
que gira fisicamente para trás é a mais rápida** (L −125,9 × R +78,9; depois
R −122,5 × L +91,0). O próprio registro se marca NÃO CONCLUSIVO — pivô esquerdo
com `speed` contaminado, direito com 21 amostras —, mas aponta para **sentido de
rotação da roda**, não para canal. Ensaio novo que ignore isso nasce no escuro.

**O padrão, agora nomeado:** eu corro para a conclusão assim que aparece um dado.
Duas vezes seguidas com o mesmo conjunto — primeiro não fui buscá-lo, depois o
li sem controlar as variáveis. A pergunta que faltou nas duas é a mesma e é
barata: *"o que mais mudou entre as duas condições?"*

### 📏 Lista de medidas da etapa 1 — e a tabela-resumo estava velha

Escrita a `ETAPA1_MEDIDAS_ROBO3.md`: o dono passa a trena e anota, eu comparo e
atualizo o URDF. Cada linha diz **o que o robô carrega hoje**, e esse "hoje" saiu
de **renderizar o xacro** e ler as origens de junta — não de redigitar fórmula,
que é como número errado se propaga.

E foi renderizando que apareceu o achado da sessão. O URDF diz bitola
**0,3225**; a tabela-resumo §5.8 da revisão cruzada dizia **0,425**. Dez
centímetros, no parâmetro que a própria revisão chama de *"o mais grave — entra
direto na odometria"*.

Cheguei a suspeitar que o robô carregava bitola errada. **Era o contrário:** a
§5.9 fechou a D5 no Gazebo e revisou a §5.7 de 0,425 para 0,3225 — o código
sempre esteve certo, e a tabela-resumo é que não foi atualizada junto.

Por que isso importa e não é detalhe de documento: é da §5.8 que a **etapa 3**
manda copiar o contorno para o `nav2.yaml` e para os polígonos do reflexo. O
bloco de contorno de lá dava lateral **±0,2375** contra os **±0,19025** reais —
footprint 9 cm mais largo por lado. E footprint inflado **não dá erro**: só faz o
planejador recusar vão por onde o robô passa, que é o defeito sem sintoma de
sempre. Conferido por grep que ninguém havia copiado os números velhos para
código ou config; o estrago estava contido na tabela.

⚠️ Ficou uma pendência de 8 mm que a trena resolve: a largura da roda é **0,050**
na tabela e **0,058** no URDF. Virou a medida M3 da lista.

**A regra que a própria §5.9 deixou, e que se confirmou de novo:** medida de
geometria que sobrevive a duas leituras vai para o Gazebo **antes** de virar
decisão. Desenhar responde o que a trena não perguntou.

### ✅ ETAPA 1 FECHADA NO MESMO DIA — trena, 8 fotos, e duas divergências mortas

O dono passou a trena e mandou os números com fotos. Quatro valores do URDF
mudaram, e **nenhum teste quebrou** (104 passed em `test_urdf_robo3` +
`test_configs_coerentes`; a suíte segue em 847, com as 8 do `twist_mux`
vendorizado).

| | era | virou | como saiu |
|---|---|---|---|
| `roda_separacao` | 0,3225 | **0,320** | (38,0 + 26,0)/2 |
| `roda_largura` | 0,058 | **0,060** | (38,0 − 26,0)/2 |
| `boba_raio` | 0,025 | **0,020** | chão → centro da rodinha |
| `altura_solo` | 0,070 | **0,065** | topo 20,0 − corpo 13,5 |

**O método, e eu errei a estatística dele na primeira escrita.** As duas
grandezas saem de extremo-a-extremo (38,0) e interna-a-interna (26,0): a bitola
pela **soma**, a largura pela **diferença**. Eu escrevi que o truque da
diferença tinha feito a bitola fechar — e é o contrário:

```
largura = (38 − 26)/2   viés comum às duas leituras CANCELA   -> robusta
bitola  = (38 + 26)/2   viés comum SOMA                       -> não cancela
```

Ou seja: a largura de 6,0 é sólida; a bitola de 32,0 é **nominal plausível**.
Três caminhos apontam o mesmo lugar (trena 32,0, Gazebo 32,25 da §5.9, e "o
corpo encosta nas rodas"), o que descarta **erro grosseiro** — mas concordância
entre métodos **não é barra de erro**, e eu tinha vendido os 2,5 mm como se
fosse. Os 42,5 da §5.7 morreram de vez; a precisão da bitola, não.

➡️ A bitola é o divisor do `wz`: 1% aqui é 1% em **todo** giro. Fecha por
**ensaio de pivô** com o LIO, não por trena. Entra na etapa 8.

**D4 nunca foi caimento — era um número errado.** O modelo inventava um "suporte
de 10 mm" sob a boba para explicar 1 cm de diferença entre duas fitas. Com
topo 20,0 e corpo 13,5, o fundo está a 6,5 — que é exatamente o "6,5 da boba até
o corpo" medido. Dono: *"ele está sim alinhado, não está caído não."* Uma
hipótese mecânica inteira existia só para acomodar um valor errado.

**D3 encerrada** pelo mesmo tipo de medida: chão até o **centro** da rodinha =
2,0 cm, e com ela apoiada essa altura **é** o raio. O empate 40 × 50 mm da
§5.5.1 acabou sem precisar de discussão.

**E a placa foi respondida** (§5.1, o item de maior alavancagem): *"mesmo modelo
do 1 e do 2, mas não a mesma."* Saída boa — o modelo de atuador sobrevive e a
etapa 8 vira conferência. Mas é mesma **classe**, peça diferente: os números do
`MODELO_ROBO2.md` entram como ponto de partida, não como medida deste robô.

> ⚠️ **Corrigido mais adiante NESTA MESMA ENTRADA:** o "vira conferência" está
> errado. "Mesmo modelo" não prova "mesmo firmware", e a configuração gravada
> nesta placa é desconhecida — a etapa 8 segue sendo **medição** do atuador.
> Deixo a frase original porque diário é registro do que se pensou na hora; o
> ponteiro é para ninguém parar de ler aqui e sair com a conclusão errada.

⚠️ **Um perigo de processo, pego a tempo:** o zip com as fotos foi parar na raiz
do repo, não rastreado. Eu venho commitando com `git add -A` — o commit seguinte
teria enfiado 2,7 MB de foto de WhatsApp no histórico, onde não se tira mais.
Entrou no `.gitignore`. Evidência de medida **é** versionada aqui, mas em
`docs/dados/<data>-<assunto>/`, com nome que diga o que a foto mostra.

➡️ E foi o que se fez, a pedido do dono: as 8 fotos estão em
`docs/dados/2026-09-17-robo3-trena/`, nomeadas **pelo ponto de vista** e não
pelo número que mostram. O README de lá carrega um aviso que vale o registro:
**os números autoritativos são os que o dono ditou, não os que se lê das fotos.**
Nelas a fita aparece angulada e em várias o zero está fora de quadro ou atrás da
roda — rederivar milímetro dali produziria número novo com cara de medida, que é
como a D2 e a D5 nasceram. Se um valor for contestado, mede-se de novo; não se
amplia a foto.

Suíte depois de tudo: **847 passed** (era 845; +2 são os testes novos), com as
mesmas 1 falha e 7 erros do `twist_mux` vendorizado. **Nada implantado no robô.**

## 2026-09-17 (dev, robô desligado) — O PLANO DO NAV2 LEVOU UMA REVISÃO E CAIU

Fracasso documentado, que aqui é resultado: o `PLANO_NAV2_ROBO3.md` escrito
ontem foi confrontado com o código, linha por linha, e **duas etapas inteiras
não param de pé**. Virou v2. Os seis erros, todos conferidos e nenhum refutado:

1. **Etapa 3 impossível**: `pilha.launch.py:556` inclui `sim.launch.py`, que é o
   **robô 2**. Fugir disso com `sim:=false` deixa a pilha toda sem
   `use_sim_time`. E `cmd_vel_to_wheels` publica `WheelSpeeds`, que no Gazebo
   não tem consumidor — o sim do robô 3 termina em `ros2_control`. "Fechar a
   cadeia até o `cmd_vel_to_wheels`" não provaria movimento nenhum.
2. **A costura não era uma**: a cadeia do robô 2 é inteira `TwistStamped`
   (compensador, `collision_monitor`, mux) e a do robô 3 inteira `Twist`. São
   dois contratos. E dois launches disputam o mesmo mux.
3. **Etapa 5 sem TF**: ninguém sobe `robot_state_publisher` no robô 3, e o
   `tf_odom.py:114` se recusa a publicar `odom → base_link` sem
   `base_link → livox_frame` — a mensagem de erro dele já mandava conferir o RSP.
4. **O giro de 180° não é trocar 3 sinais de x**: o trail da boba é fixo em −x
   (garfo, visual e junta da roda). Junto vêm esquerda/direita, o yaw do
   `livox_frame`, a envolvente varrida pelas bobas e o `test_urdf_robo3.py`.
5. **8,25 cm, não 8,35**: o comentário do próprio xacro erra 1 mm, e o teste
   prova (a roda passa exatamente 2 cm da traseira da caixa).
6. **Eu errei o `scan_2d`**: como `target_frame` é `base_link`, que está no chão,
   `min_height` 0,15 continua sendo 15 cm do chão com sensor a qualquer altura.
   O que muda com a altura é a **região observável**, não a margem do piso.

Achado de brinde, sem relação com o robô 3: **`test_scan_2d.py` está vermelho**
— procura um `robot_radius` que saiu do `nav2.yaml` na decisão 032.
`test_urdf_robo3.py` 21/21 e `test_configs_coerentes.py` 83/83 passam.

A lição que vai para o artigo é velha e voltou: **v1 planejou por cima da
arquitetura em vez de dentro dela.** Ler o `pilha.launch.py` antes de escrever
"subir a pilha" teria custado 5 minutos. A ordem nova põe a placa e a geometria
na frente e só sobe o Livox na etapa 7 — assim o robô 2 navega até lá.

### Mais duas rodadas no mesmo dia (v2.1 e v2.2)

**Segunda revisão — cinco ajustes, todos procedentes.** Classificação de
parâmetros (meia largura, corredor de ré e recuo do para-choque eram geometria,
não calibração por CSV); a fronteira `TwistStamped → Twist` tinha de ser
**decidida** na etapa 5, não adiada com a palavra "conversão"; a parada física
independente do Xbox virou pré-requisito de **toda** etapa energizada, não só da
última; e a validação do LIO passou a cobrir a pose 6D inteira.

**Terceira revisão — e ela achou um erro MEU, dentro do conserto que eu mesmo
tinha proposto.** Ao fechar a etapa 0 escrevi que a envolvente do robô 3 era
0,196 m. Isso é a meia-diagonal em torno do **centro da caixa** — mas o
`scan_2d` produz no `target_frame: base_link`, e no robô 3 a C8 pôs o
`base_link` no **eixo das motoras**, com a caixa deslocada 0,093 m. O valor certo:

    √((0,093 + 0,1555)² + 0,120²) ≈ 0,276 m

No robô 2 a minha conta funcionaria (lá o `base_link` **é** o centro da caixa), e
foi essa memória que me traiu. **Caí na armadilha da C8 no mesmo documento em que
a citei** — o xacro avisa em letras grandes que comparar coisa do robô 2 com o
robô 3 exige saber que a origem mudou de lugar, e eu comparei assim mesmo.

Ainda dessa rodada, e mais importante que o número: **estar na faixa vertical do
`pointcloud_to_laserscan` não significa ser visto pelo Livox.** FOV, orientação,
oclusão e distância no frame certo mandam junto, e fazer isso direito exigiria
ray casting. Então o teste ganha uma cota conservadora do URDF, e a validação de
verdade fica para a etapa 9, com nuvem real do robô parado.

O padrão das três rodadas, que vale registrar: **nenhuma achou erro de direção —
todas acharam erro de detalhe verificável.** Os dois primeiros erros foram de não
ler o código antes de planejar; o terceiro foi de herdar um número de outra
máquina, que é o defeito que o `CLAUDE.md` proíbe em letras grandes.

### Quarta rodada (v2.3) — e o melhor achado do dia não foi um erro, foi um risco

Três incoerências minhas, todas verdadeiras: o texto dizia "quatro classes" com
**cinco** enumeradas fora de ordem; `range_min` e `laser_min_range` continuavam
classificados como **geometria** no mesmo documento que dizia que eles só fecham
na etapa 9 com autorretorno real (se o número depende do que o sensor devolve,
ele é **percepção**); e a etapa 0 prometia testar "por robô" quando existe **um**
`scan_2d.yaml` só — os perfis nascem na etapa 4 e a geometria do robô 3 só fecha
nas etapas 1 e 3. De quebra, eu havia chamado o conserto de "uma linha": não é,
calcular a envolvente do URDF exige interpretar caixas, rodas, alturas e TFs.

**O risco conceitual, que é o que vale guardar:** `range_min` é um corte
**radial**, e o robô 3 é muito assimétrico no `base_link` — nariz a 0,0825 m,
cauda a 0,2485 m. Dimensionar o corte pela cauda deixa

    0,276 − 0,0825 ≈ 0,19 m de CEGUEIRA À FRENTE

Subir o `range_min` até o autorretorno sumir apaga junto o obstáculo colado na
frente, que é exatamente onde o robô anda. Seria trocar um defeito sem sintoma
(anel fixo travando o AMCL) por outro sem sintoma (obstáculo invisível na
direção de marcha) — e este projeto já perdeu dias com defeitos que não avisam.

Por isso a etapa 9 passa a exigir **os dois lados**: nuvem do robô parado sem
autorretorno **e** um obstáculo alto logo fora do contorno continuando visível.
Se um `range_min` único não fizer os dois, a saída registrada **não é aumentar o
corte** — é filtro espacial/angular de autorretorno, por *onde* o ponto está e
não por *quão perto*. Fica escrito para não ser reinventado no susto.

### Quinta rodada (v2.4) — a trava que eu criei vetava a própria saída

E a rodada seguinte mostrou que eu tinha escrito uma **contradição lógica** entre
as duas etapas que acabara de ajustar. A etapa 0 exigia `range_min` **maior** que
a envolvente (0,276 m); a etapa 9 exigia enxergar obstáculo logo fora do contorno
(nariz a 0,0825 m). A faixa entre os dois:

    0,0825 m  ──── FORA do robô, e cortada pelo range_min ────  0,276 m

Um obstáculo aí está fora do corpo e some do `/scan`. Pior que o buraco: o teste
da etapa 0 **vetaria a solução por filtro espacial antes de a etapa 9 poder
avaliá-la**. Teste que petrifica um chute é pior que teste nenhum, porque parece
rigor.

A relação certa, e é o que ficou no plano:

    autorretorno visível máximo  ≤  envolvente geométrica

A envolvente é **cota superior de onde o autorretorno pode estar** — não piso
obrigatório do corte. Com filtro espacial, o `range_min` pode e deve ser pequeno.
Então a etapa 0 passa a só tirar a dependência do `robot_radius`, conferir
coerência e calcular a envolvente **como diagnóstico**; quem mede e escolhe é a
etapa 9; e o teste só ganha dente **depois** dela, validando a estratégia
escolhida. Entra na etapa 0 também o comentário do `scan_2d.yaml:48`, que afirma
como regra (*"`range_min` 0,35 > raio do robô"*) o que esta rodada derrubou.

### ✅ ETAPA 0 EXECUTADA — a primeira linha de código do arco inteiro

Aprovada depois da sexta revisão, e feita no mesmo dia. O que foi:

- **removido** `test_o_robo_nao_se_enxerga_como_parede`, inválido em dois
  sentidos: lia um `robot_radius` que saiu do `nav2.yaml` na decisão 032 (por
  isso vermelho desde então) **e** afirmava a desigualdade inversa da certa;
- **no lugar dele ficou o porquê**, em comentário: a relação correta
  (`autorretorno ≤ envolvente`), o motivo de não ser piso do `range_min`, a
  conta dos 19 cm de cegueira à frente no robô 3, e o aviso explícito de que
  **isso deixa o autorretorno sem teste de propósito** até a etapa 9 medir;
- **removida** a constante `NAV2`, que ficou órfã;
- **reescrito** o comentário categórico do `scan_2d.yaml`, que afirmava a regra
  derrubada e citava o mesmo parâmetro extinto. O valor 0,35 **não mudou** —
  mudou a justificativa, que agora diz que ele é herdado e não validado;
- **não encostei** no teste de coerência AMCL↔fatia, que já passava.

Resultado: `test_scan_2d.py` **7 passaram, 0 falharam** (era 1 falha / 7).

⚠️ Um susto no caminho, que vale registrar porque é armadilha de ambiente: a
suíte do `robot_motion` deu 3 `ModuleNotFoundError: No module named
'robot_motion'`. **Não era meu** — faltava `source install/setup.bash`. Conferido
dos dois lados: com o ambiente carregado dá 83 passed, e com as minhas mudanças
no `git stash` dá 83 passed igual. A lição é a de sempre aqui: antes de culpar
a mudança, reproduzir sem ela.

### 🔴 E a segunda armadilha, que vale mais que a etapa 0 em si

Puxando esse fio apareceu uma coisa que pode custar uma sessão inteira a quem
não souber: **o resultado da suíte depende de COMO ela é chamada.**

| invocação (com ROS carregado) | resultado |
|---|---|
| `pytest` da raiz, sem argumento | **845 passed**, 1 failed, 7 errors (todos em `twist_mux/test/test_joystick_relay.py`) |
| `pytest ros2_packages/` | **no tests collected**, aborta no 1º import |
| `pytest <arquivo>` | passa |

E as 8 que sobram na invocação certa **não são nossas**: `twist_mux` é pacote de
terceiro vendorizado (4.5.0, Apache 2.0, mantenedor upstream), o arquivo de
teste nem é rastreado pelo git, e são testes de `launch` que sobem nós ROS — ao
rodar sozinhos eles **penduram** (estourei 120 s). Não confundir com defeito
nosso: os 5 arquivos mexidos hoje não encostam nesse pacote.

O aborto vem com `ImportError: cannot import name 'DurabilityPolicy' from
'rclpy.qos' (unknown location)` — que **parece** defeito grave de dependência e
não é nada: o `rclpy` real resolve certo para `/opt/ros/jazzy/...`, não há
`rclpy` no repo, não há `conftest.py` nem cópia de teste em `build/`. É só a
raiz que o pytest insere no `sys.path` mudando conforme o alvo.

Duas hipóteses minhas caíram no caminho (coleta duplicada em `build/`; diretório
`rclpy` sombreando), as duas verificadas e descartadas — registradas porque
hipótese descartada com evidência é o que impede a próxima pessoa de refazê-la.

**Consequência prática:** a nota da outra sessão de hoje ("a suíte tem as mesmas
2 falhas: `test_scan_2d`, `test_plano_suavizado`") está **meio errada**. O
`test_scan_2d` era real e foi consertado aqui; o `test_plano_suavizado` **passa
10/10** quando invocado direito. Ficou um defeito fantasma no registro por causa
da invocação — exatamente o tipo de coisa que este diário existe para matar.

### Sexta rodada (v2.5) — "teste diagnóstico" é teste que não afirma nada

A última achou o excesso que eu tinha deixado ao consertar o excesso anterior.
Para não petrificar o corte, a v2.4 mandou a etapa 0 calcular a envolvente
"só como diagnóstico, sem asserção". Dois problemas: **(a)** a coerência que
isso protegeria **já é testada** — `test_o_alcance_do_amcl_bate_com_o_do_SCAN`
exige *igualdade* entre `laser_min_range` e `range_min` (e entre os `max`),
cruzando `robot_motion` e `robot_base`, e passa hoje; **(b)** um teste que não
afirma nada é código a manter com **aparência** de rigor — pior que não ter.

A etapa 0 ficou no osso: remover o teste inválido, corrigir o texto dele e o
comentário categórico do `scan_2d.yaml:48`, manter o de coerência. O cálculo da
envolvente — a parte cara — espera haver estratégia de filtragem para validar.

E a etapa 9 deixou de fechar na escolha: ela está **incompleta** enquanto os
testes da estratégia escolhida não existirem. Chamar aquilo de "depois da 9"
deixava a etapa terminar com uma decisão tomada e nada travando, que é como
escolha vira folclore aqui.

**O padrão das seis rodadas**, e é a lição do dia para o artigo: as duas
primeiras acharam erro de arquitetura (não li o código antes de planejar), a
terceira um número herdado de outra máquina, a quarta incoerência de texto, a
quinta **uma trava que eu mesmo inventei e que impedia a solução certa**, e a
sexta **uma proteção que não protegia**. Nenhuma das seis achou erro de direção.
O plano estava indo para o lugar certo desde a v1; o que faltava era ele ser
verdadeiro nos detalhes — e três das seis correções foram contra excesso meu,
não contra falta.

## 2026-09-16 (dev, robô desligado) — CONTORNAR: A RÉ VIRA A FRENTE

Sessão curta e de propósito sem investigação. O dono cortou o roteiro de pivô
limpo + reta que o `ESTADO_PROJETO` planejava para hoje: *"inverte aí a ré e a
frente, quero só que esse bixo funcione, não descobrir o porquê ele anda reto
errado"*. Como a ré já anda reto nos dois robôs, promover a ré a frente é o
contorno mais barato — e a pergunta de 15-09 fica aberta, registrada.

A armadilha que quase custou a sessão: **já existia** um `sinal:=-1.0` no launch
do robô 3, e ele NÃO faz isso. `sinal` multiplica as duas rodas, o que é uma
reflexão — inverte `speed` e `steer` juntos, e foi reprovado pelo dono em 14-09
justamente por trocar o giro (decisão 048, problema 2).

Virar o robô de costas é uma **rotação**: troca o sentido da frente E qual roda
é a esquerda, e as duas inversões se cancelam no termo do giro. Na conta, isso
é negar só o `linear` e não tocar no `angular` — parâmetro novo `linear_sign`
no `cmd_vel_to_wheels`, exposto como `frente:=` no launch. Conferido na conta
(o pivô puro e o giro com frente não mudam de sinal; só o `speed` inverte):

    frente 0,30 m/s              hoje  speed +120,0  →  novo  speed −120,0
    frente + manche p/ esquerda  hoje  yaw +4,00     →  novo  yaw +4,00

Virou o **PADRÃO** do robô 3 na mesma sessão, a pedido do dono: `bash
bin/sobe-robo3` sobe assim, sem argumento (`frente:=1.0` volta a frente
antiga). Pega o analógico e o `dpad_reto`, que passam os dois pelo mesmo nó.
O default DO NÓ fica em 1.0 de propósito — ele é compartilhado com o
`robot.launch.py` do robô 2, e mudar lá viraria a frente do robô 2 sem
ninguém pedir. Decisão 049. **Nada foi ao robô** — falta `bash bin/sobe-robo3`.

⚠️ O contorno pode falhar de um jeito específico: se a causa do desvio for do
LADO (canal, cabo) e não do SENTIDO, o puxão troca de lado junto com a frente e
o robô volta a andar torto. É a primeira coisa a olhar no teste.

## 2026-09-15 (robô 2, noite) — NÃO SUBIA: O LIDAR ESTAVA EM OUTRO IP

Sintoma: a pilha de navegação abortava (`Failed to activate global_costmap
because transform from base_link to map did not become available`) e o
`heading_controller` repetia `sem /Odometry`. A placa estava viva
(`/hoverboard/connected: true`).

Causa, na ordem em que apareceu:
1. Rede: o PC de dev estava na `Visitantes` e o NUC em `10.127.116.205`. Sem
   rota. Depois de trocar, o ssh deu `Host key verification failed`, mas era só
   o IP novo: a chave era a mesma já salva sob outros IPs.
2. `/livox/lidar`, `/livox/imu`, `/Odometry` e `/scan` mudos.
3. No cabo do lidar (`enp1s0`, não mais `enp2s0`): `.169`
   (`e4:7a:2c:90:1d:f1`) FAILED no ARP; um Livox em **`.158`**
   (`e4:7a:2c:95:df:da`) responde ping. Os dois valores já constavam no
   README do config.

Conserto: `lidar_configs[].ip` para `.158` (`56e6bda`). Resultado:
`/livox/lidar` 7,5 Hz, `/Odometry` 10 Hz, `/scan` 10,5 Hz; os dois
pré-voos com Translation, `/joy` 14 Hz com o Xbox em `js0`, web na 5000.

Deploy fora do padrão: o NUC está **67 commits atrás** e o `git fetch` dá
`Permission denied (publickey)`. Fiz `git push` do dev direto para o
`refs/remotes/origin/main` do NUC por ssh, e depois `reset --hard`. Continua
sendo git, não scp. A chave do GitHub no NUC fica pendente.

## 2026-08-20 — DESFAZENDO UMA LEVA DE 12 MUDANÇAS, E O QUE SOBROU DELA

Sessão inteira no Gazebo, sem robô. Começou com o dono relatando que uma leva
automatizada da manhã (12 corridas, `constancia-gargalos-gazebo`) tinha PIORADO
a passagem pela porta: *"ele passa, mas um lixo, tem que parar pra ajeitar"*.

### O que os dados daquela leva mostraram

Piora monotônica, medida nos resumos dela mesma (perna de ida):

    continua_02    2 paradas    0,4 s parado    0 recuperações
    continua_10   22 paradas   39,9 s parado    8 recuperações
    continua_11   41 paradas   61,0 s parado   14 recuperações

Doze mudanças, zero repetições — o `ESTADO_PROJETO.md` mandava repetir 3x sem
mexer em nada antes de abrir qualquer mudança, e isso não foi feito.

### A causa raiz: o teto de velocidade dentro da porta

`passagem_v_max: 0.25` foi posto para "dar tempo de corrigir no vão". Faz o
contrário. Ganho da movimentação e curvatura parasita, medidos no bag:

    v = 0,40-0,60 m/s   ganho 0,16   curvatura  -0,12 1/m
    v = 0,22-0,28 m/s   ganho 0,45   curvatura  +0,55 1/m

4,6x maior e de sinal oposto. É o cuidado do robô 1 que o `CLAUDE.md` diz valer
DOS DOIS LADOS: nunca escalar wz parcialmente sem conhecer a zona-morta do
atuador. Aqui ela é por RODA, então baixar a linear aproxima as duas rodas do
limiar e a movimentação passa a amplificar o giro. O yaw dispara no ciclo
seguinte ao teto armar: `x=8,03 yaw +15°` → `x=8,40 yaw +46°`.

### E a travada nunca foi risco de colisão

Reconstruindo o polígono do reflexo e o corpo em toda travessia:

    folga do CORPO até a jamba      +3 a +12 cm   cabia sempre
    folga da CAIXA do reflexo       -2 a -13 cm   vetava

Quem para é sempre o `PolygonStop`. Existe uma faixa de 7 a 16 cm de offset em
que o reflexo veta e a física passa — e o robô vivia nela. **Palavras do dono,
e viram critério de projeto:** *"o collision monitor não foi feito para ajeitar
a posição e fazer manobra, ele foi feito pra parar impactos inevitáveis, com
obstáculo fora do mapa, não obstáculo conhecido"*.

### O outro defeito da leva: singularidade no alvo

`alvo_estavel_de_passagem` mira o CENTRO do vão. Quando o robô chega nesse
ponto a distância ao alvo vai a zero e o rumo pedido é `atan(desvio/distância)`:
com alvo a 0,14 m e 10 cm de desvio, 36°. O robô girou atrás do próprio alvo,
cruzou a soleira a +86° e ficou 55 s preso. E falha de forma INSTÁVEL: o mesmo
código atravessou a +1,6° às 13:56 e girou 90° às 14:37.

### Resultado na pista

Com o teto neutro e a travessia de gargalo desligada, três corridas seguidas:

    corrida_01   111,5 s   0 paradas   1 invasão   desvlat mediano 6 cm
    corrida_02   112,7 s   0 paradas   2 invasões  5 cm
    corrida_03   140,3 s   0 paradas   0 invasões  5 cm

Primeira configuração do dia que repete.

### No mapa real (`sala_andar3`), o S do corredor

Três tentativas, duas reprovadas:

    tol_estica 0,07 -> 0,03    reprovou: prendeu a mira no curto (80%), S igual
    rumo_estica 3° -> 6°       reprovou: "piorou demais a curva"
    mira_rumo_passo -> 0,40    APROVADO: "agora foi bom, gostei dessa"

O achado por trás: os dois critérios da mira são inconsistentes. `tol_estica`
0,07 aceita raio >= ~2 m; `rumo_estica` 3° aceita raio >= 15,3 m. O de rumo
anula o de desvio sempre — 14,2% contra 77,2% em 219 amostras de plano real.
A terceira tentativa mudou só a RÉGUA (filtra serrilhado antes de medir), sem
tocar em limiar de proteção.

### Erros meus, porque fracasso documentado é resultado

1. **Cinco pilhas empilhadas.** Meus padrões de `kill` deixaram de fora
   `robot_state_publisher`, `placa_simulada`, `parameter_bridge` e o
   `ros2 daemon`. Cinco `path_follower` publicando comando = robô andando
   sozinho; cinco relógios = "jump back in time". Já estava no `MEMORY.md` que
   isso custa horas, e custou de novo.
2. **Dois alarmes falsos por medida errada.** Comparei `map` e `odom` com dois
   `tf2_echo` sequenciais, 8 s de intervalo, robô a 0,5 m/s — e chamei de "AMCL
   1 m deslocado" o que era o robô tendo andado. Pareado no bag, o erro era de
   4,6 cm. Mandei parar uma corrida boa por causa disso. Também usei
   `--no-daemon` em `ros2 topic hz`, que não existe: o comando falhava e eu lia
   como "sem dado".
3. **Sobrescrevi `worlds/sala_andar3.sdf`**, versionado e com mesh `.obj`, com
   um mundo gerado por mim. Restaurado do git.
4. **Levei o `suave` ao robô com evidência de bancada.** A folga era medida
   contra o MAPA, num plano parado. Ele bateu a traseira. É a lição da 041 pela
   segunda vez: bancada promove candidato, quem aprova é a corrida.

### Aberto para a próxima

- **CPU satura e estraga a corrida**: carga 15,75 em 12 núcleos, com o
  `ros2 bag record --all-topics` a 68% escrevendo 560 MB/min da nuvem e o
  `/scan` caindo para 6,2 Hz. Usar `bag:=false` quando não precisar do `/plan`.
- **O plano corta quinas**: na travada do mapa real o robô estava numa área
  aberta e o plano passava a 5 cm da quina. Mexe no costmap.
- **`curv_frente: -0.817` com `curv_medido_em: HERDADO`**: medido no robô real
  em 04-08 e aplicado à planta simulada, que mede entre 0 e +0,2 1/m. No robô,
  medir a curvatura do dia é o protocolo que o próprio `compensador_rumo.py`
  manda seguir e que nunca rodou no simulador.
- **`passo 0,40` não tem repetição.** As duas tentativas foram perdidas (uma
  por eu matar o `gz sim` da própria pilha, outra por CPU).

## 2026-08-19 (última leva no Gazebo) — MELHOR BASELINE OBSERVADO ATÉ AGORA

Veredito visual do dono ao encerrar: **“foi e voltou perfeitamente”** e
**“essa se torna a melhor até agora”**. O robô atravessou a porta corretamente
na ida, tinha trajetória livre para terminar o objetivo 1 e depois retornou à
sala pelo objetivo 2. Também fez o pivô necessário, sem substituir a manobra
por um balão grande.

O objetivo 1 não deve ser contabilizado como falha nem como chegada: ele foi
**preemptado pelo envio do objetivo 2 antes de terminar**. Naquele momento o
robô já havia passado pela porta e seguia normalmente. O objetivo 2 terminou
com `Goal succeeded`.

Evidência desta corrida:

- CSV: `docs/dados/2026-08-19-sem-re-aleatoria/seguidor_2026-08-19_211353.csv`;
- rosbag: `docs/dados/2026-08-19-sem-re-aleatoria/corrida_2026-08-19_211348/`;
- início do retorno em aproximadamente `(6,04; 2,70)`;
- pivô disparado com erro de rumo de `+166°`; após o pulso ainda faltavam
  cerca de `20°`, e o seguidor retomou o plano e concluiu sem fazer o balão.

Configuração que produziu o melhor resultado: `SmacPlanner2D`, multiplicador
de custo 5, footprint orientado igual ao `PolygonStop`, replanejamento a
0,2 Hz, timeout de plano de 7 s e mira curta de **0,37 m**. A mira de 1,0 m só
é liberada quando o metro seguinte é essencialmente reto; se há curva próxima,
o seguidor permanece olhando perto. A tentativa de mira curta de 0,15 m foi
ruim, fez o robô se perder do plano e **não pertence a este baseline**.

Este resultado ainda é uma observação manual `n=1`, não validação estatística.
Na próxima sessão, preservar exatamente esta configuração e repetir primeiro
o mesmo percurso várias vezes antes de qualquer nova alteração.

## 2026-08-19 — A PORTA VOLTOU, A VOLTA FUNCIONOU E A “RÉ” DA IDA ERA O FREIO

Depois de uma sequência de experiências com pivô, chegada e corte do plano que
regrediram a travessia, o movimento/planejamento foi restaurado ao `HEAD`
`cd016e8`. A versão restaurada voltou a atravessar a porta na ida e na volta.
Ficou o ajuste do AMCL (`alpha1=0.01`, `alpha4=0.001`), que reduziu a perda de
pose nos giros.

O collision monitor foi comparado com o robô 1. A tentativa de retirar o
`PolygonStop` aproximou demais o robô do obstáculo e foi revertida. Em vez
disso, o `path_follower` recebeu a saída segura do robô 1: traseira bloqueada +
frente livre permite um escape frontal limitado a 0,20 m, com o vão rechecado
em cada ciclo. A ré ganhou uma condição adicional: falta de progresso não
basta; deve existir bloqueio frontal medido em até 0,20 m e espaço atrás. Onze
testes específicos passaram.

Na corrida manual final (`docs/dados/2026-08-19-sem-re-aleatoria/`), os dois
goals terminaram. A volta foi a melhor observada pelo dono. Ao restarem cerca
de 22° após o pivô, havia 2,45 m livres à frente; a nova regra recusou a ré,
o planejamento retomou e o robô terminou sozinho. Esse comportamento é o novo
referencial.

A análise do CSV separou o que visualmente parecia a mesma coisa: foram 49
amostras de recuperação com velocidade positiva e zero com velocidade
negativa. Não houve ré automática. Os dois movimentos de recuperação foram
escapes frontais de ~0,20 m. As três “mini-rés” percebidas na ida coincidem com
cortes do `PolygonStop`, após os quais o `compensador_rumo` pede contra-torque
`-0.50` para cancelar a inércia. A ida, portanto, ainda sofre com a atuação do
freio; a volta e a decisão de seguir em frente estão corretas.

Próxima sessão: modificar uma causa só. O freio deve virar uma frenagem melhor
fechada pela velocidade longitudinal medida, reduzindo/encerrando o
contra-torque antes de produzir recuo perceptível. Não simplesmente desligar:
sem ele a placa mantém movimento por ~0,52 s e acrescenta ~0,10 m depois do
corte. Não mexer simultaneamente em Smac, pivô, AMCL, collision monitor ou
desencalhe. Medir velocidade mínima e deslocamento em cada atuação e exigir
três idas/voltas sem tranco, contato ou ré indevida, preservando a volta atual.

## 2026-08-14 (2ª leva) — DOIS DEFEITOS DE VERDADE, E QUATRO TENTATIVAS MINHAS QUE FALHARAM

> Dev + Gazebo, o dono na tela até o almoço; o protocolo final rodado pelo
> assistente com autorização explícita dele. Decisão **040**.
> Dados: `docs/dados/2026-08-14-porta-gazebo/`.

### A forma do dia, e ela é a lição

Oito corridas. **Quatro mudanças minhas foram reprovadas com número e duas
correções de defeito ficaram.** A diferença entre as duas listas é sempre a
mesma: as que falharam mexiam em NÚMERO; as que ficaram consertaram MECANISMO.

O dono disse duas vezes que estava piorando (*"essa porra tá piorando a cada
atualização"*, *"joga esse seguidor no lixo"*) e ele estava certo nas duas —
eu continuei sintonizando em cima de um sinal corrompido.

### 🔴 Defeito 1 — o seguidor comparava `map` com `odom`

O `path_follower` lia pose em `odom` e plano em `map` **sem TransformListener
nenhum no arquivo**. A diferença entre os frames é a correção do AMCL:

```
corrida A   salto p90  14,3 cm   deriva total   76 cm
corrida E   salto p90 100,3 cm   deriva total  833 cm   (o AMCL fugiu)
```

Ele dirigia para fechar um desvio que **não existia**, e que pulava a cada
atualização do AMCL. Isso explica o S, a entrada torta e — o mais importante —
por que cada melhoria de responsividade minha PIORAVA: mais fidelidade ao sinal
errado.

### 🔴 Defeito 2 — o pivô era o único caminho sem freio

`heading_controller` dava `return` dentro do pivô ANTES do bloco do freio de
giro (037). Varredura medida: **150 a 310° por pulso** (p50 170°) — o dono viu
como *"metendo um monte de 180"*. Com o freio chegando lá: **91° e 131°**, que é
a ordem certa para o gatilho de **80°** que ele pediu na 036.

🟢 **E foi isso que fez o pivô existir**: *"FOI PORRA FOI, AGORA O PIVO DELE
EXISTE E GIRA NA HORA CERTA PRA PASSAR A PORTA"*.

### O que eu errei, com nome e número

| tentativa | mediu | veredito |
|---|---|---|
| `k_lat=1,0` (Stanley sem limite) | amplitude p90 20,0° → **39,8°** | reprovado |
| `k_lat=0,5` + limite de taxa | inversões 26,9 → **30,5**/min | reprovado |
| pivô em 34° com `a_dec` 6,6 | varredura **150–310°**/pulso | reprovado |
| pivô em 34° com `a_dec` 6,6, já com freio | varredura **91–131°** | reprovado |

🔴 **O `pivo_a_dec` real é 0,79** (medido). O valor que já estava lá era 0,6;
eu inventei 6,6 **duas vezes**, errando por ~8× nas duas. **Derivação não é
medida**, e a régua sempre existiu — bastava rodar antes de mexer.

Também derrubei a proposta de virar o robô de ré (o dono levantou de manhã) —
mas essa foi descartada com dado bom: o Gazebo erra a porta igual, e lá não há
boba nem arco. Fracasso útil.

### O número que atravessou o dia e continua aberto

```
período da oscilação de rumo, 7 corridas:  2,0 a 2,8 s  — CONSTANTE
enquanto mudavam lei, ganho, mira, pivô, frame e histerese
```

Relé com tempo morto `L` oscila em ~4L; `atraso_desliga` = 0,52 s → 2,08 s. A
placa É um relé (020). ➡️ **Se confirmar, nenhuma reescrita do seguidor mata o
S** — o alvo vira a placa. É a hipótese mais importante em aberto.

### Log de toda corrida (pedido do dono)

Dois furos, não um: `csv` nascia vazio **e `grava()` nunca era chamado** —
código morto desde sempre. Nenhuma corrida deste projeto tinha sido gravada
pelo nó, e a primeira corrida BOA de hoje se perdeu por isso. Agora `log_dir`
(default `~/logs_robo2`) liga CSV + bag nos DOIS perfis, sem opt-in, como o
robô 1 faz.

### 🔴 O PROTOCOLO DE 5 CORRIDAS: 1 PASSOU, 4 TRAVARAM

Rodado pelo assistente com o dono no almoço (autorização explícita dele, que
inverte a regra de "Gazebo só sobe com o dono olhando"). Pilha NOVA a cada
corrida — `tools/banco/protocolo_porta.sh`.

```
corrida  veredito       parou em       folga   sobra p/ corpo   yaw     reflexo
   1      PASSOU     (+6.15,+3.71)     0.949      +0.722       no alvo  NÃO AGIU
   2      TRAVOU     (+4.64,+1.41)     0.402      +0.175       -10.2°   14x, 51 s
   3      TRAVOU     (+4.65,+1.58)     0.347      +0.120       -16.7°    4x, 69 s
   4      TRAVOU     (+4.72,+1.52)     0.408      +0.180       -33.6°    3x, 70 s
   5      TRAVOU     (+4.92,+1.58)     0.353      +0.126       -33.2°    3x, 69 s
```

🔴 **Em nenhuma falha o corpo invadiu o mapa** — parou com 12 a 18 cm de folga
por lado e ficou congelado ~69 s. Não é colisão: é o reflexo travando com
margem sobrando, porque as quatro **entraram tortas** (−10° a −34°). O
`PolygonApproach` (meia-largura 0,2575 contra 0,2275 do corpo) é projetado pela
velocidade, e a −33° a projeção alcança a ombreira antes do corpo.

➡️ **A dívida nº 1 continua a mesma: ele entra torto na porta.** As duas
correções de mecanismo de hoje eram reais e necessárias, mas atacavam outra
coisa. O próximo alvo é chegar à porta JÁ APONTADO — e o desenho que a medida
pede é o do robô 1 (`door_crossing`: alinhar até `|lat|<8 cm` e `|yaw|<5°`
ANTES de cruzar), mesmo estando desativado lá.

### Higiene: órfãos, de novo, e um vizinho barulhento

O grep da receita de limpeza não pegava `parameter_bridge` nem
`robot_state_publisher` (rodam de `/opt/ros`, não casam com "Controle_robo_livox"
nem "gz sim"). Foram se acumulando e **duas subidas falharam por isso** — o
`planner_server` estourou 65 s de ativação com load 19 em 12 núcleos. Há também
um `mysqld` de snap comendo ~1 core e reiniciando em laço, alheio ao projeto.

---

## 2026-08-14 — A RÉ MORRE COMO IDEIA, E O SEGUIDOR GANHA O DESVIO LATERAL

> Dev + Gazebo, o dono mandando o goal pelo web. Decisão **039**. Nada foi ao
> robô. Bag da sessão: `docs/dados/2026-08-14-porta-gazebo/corrida_a`.

### Como começou: a proposta de andar de ré

O dono abriu com uma ideia de projeto: *"para o robô parar de nos dar dor de
cabeça, temos a opção de fazer ele andar de ré — eu troco a direção do lidar,
vc altera os comandos pra frente virar a atual ré"*.

**A ideia tem base medida e eu concordei com a premissa**: a razão frente/ré da
curvatura é 8,3× (04-08), corroborada em 9,4× e 8,74×. Raio de 1,22 m de frente
contra 10,19 m de ré. E o argumento mais forte nem é esse — é a **calibração**:
o `curv_frente` já foi remedido três vezes (−0,817 → −0,9116 → −0,9145), anda
~12% entre sessões, e 12% de 0,82 é ~0,10 1/m sem cancelar, do tamanho do arco
INTEIRO da ré. De frente o robô depende de uma constante recalibrada toda
sessão; de ré quase não precisa dela.

**O que matou a ideia foi uma frase do dono, não uma conta minha**: *"nem no
Gazebo ele tá passando a porta sem ter que dar uma ré"*. O Gazebo (a) tem boba
que é patim (BO-4) e (b) cancela o arco de frente por construção — a
`placa_simulada` e o compensador usam o mesmo −0,817. **Se ele erra a porta
ali, o defeito da porta não é do sentido de marcha**, e virar o robô levaria o
erro junto. Ele abortou a virada na hora: *"temos que arrumar o seguidor
então"*.

➡️ **Fracasso útil, e vai para o artigo**: uma hipótese com 8× de evidência a
favor foi descartada por um teste que custou zero, porque a evidência era sobre
o eixo errado. O arco estava medido; o que ninguém tinha medido era se o arco
era o que derrubava na porta.

### O que eu errei no meio do caminho, e o dono não viu

Na resposta anterior eu tinha dito *"é o seguidor, dívida nº 1"* apoiado na
medida de 13-08. Fui conferir a procedência antes de mandar sintonizar: aquela
medida é de **`inflation_radius: 0.20`**, e o costmap mudou **duas vezes hoje**
(0.20 → 0.90, `robot_radius` 0.32 → 0.26 → 0.28). Culpar o seguidor com número
de outra configuração seria mandar o dono sintonizar a peça errada. Remedi
tudo contra o bag de hoje antes de tocar em código.

E na primeira leitura do bag eu errei duas vezes, as duas do mesmo jeito —
medindo contra a referência errada:

1. **Peguei `/compensador_rumo/cmd_vel` como saída do compensador.** É a
   ENTRADA dele (a saída no sim é `/cmd_vel_bruto`). Com isso os três eventos
   de ré apareceram como "desencalhe" e o freio não aparecia.
2. **Medi desvio de trajeto contra o plano do instante.** Dá ~zero por
   construção: o Nav2 replaneja **a partir de onde o robô está**. A medida boa
   é contra o último plano publicado ANTES de o robô sair dele.
3. E o alinhamento `map←odom` por transformada única deixava resíduo de
   **0,234 m** — do tamanho do efeito. Passou a ser interpolado no tempo.

### O número que fechou o diagnóstico

```
porta: vão de 0,880 m, corpo de 0,455 m

o PLANO cruza a 3,8 cm do centro    -> deixa 0,175 m para o corpo
o ROBÔ  cruza a 14,8 cm do centro   -> deixa 0,065 m
                                       o seguidor come 0,110 m (2/3 da margem)

desvio contra o plano bom:  p50 0,053   p90 0,088   no corte do reflexo 0,094 m
```

Bate com o robô real de 13-08 (o seguidor comia 0,082 m lá). **Mesmo defeito,
mesmo tamanho, e num simulador sem boba.** A lei era só de rumo
(`rumo_para(x, y, carrot)`), que é pure pursuit e tem erro permanente em curva
— e a porta vem logo depois de uma.

### 🔴 O FREIO LINEAR NÃO FREIA: ELE INVERTE A MARCHA

O dono viu antes de mim: *"o freio linear tá forte demais, dá um cutucão e faz
o robô recuar uns 10 cm; é pra parar o robô mas no fim tá parando e ainda
invertendo o sentido"*. **E é isso mesmo**, pego no bag separando entrada de
saída do compensador (entrada parada, saída não-nula = assinatura do freio):

```
t=33,25  engata a +0,319 m/s, manda −0,500 por 0,44 s
t=33,69  SOLTA com o robô ainda a +0,256 m/s
         ->  ele termina a −0,224 m/s      (87% da velocidade que tinha, ao contrário)
```

Aconteceu 8 vezes na corrida. O mecanismo está fechado e é **estrutural**:

```
o freio manda contra-torque e a placa entrega 0,298 m/s (020), qualquer que
  seja o pedido               -> não tem proporção: é sempre no talo (o cutucão)
ele SOLTA por realimentação de velocidade  (freio_solta_em = 0,25 m/s)
mas a placa RETÉM o comando por atraso_desliga = 0,52 s   (medido 04-08)
```

🔴 **O tempo morto (0,52 s) é MAIOR que o evento inteiro de frenagem (0,44 s).**
Malha fechada com tempo morto maior que o transitório não tem como não passar
do ponto — não é ganho mal escolhido, é a forma da lei. A velocidade durante a
frenagem quase não responde (0,319 → 0,256 em 0,44 s = 0,14 m/s² de
desaceleração); **todo o efeito chega depois que o freio já soltou.**

Dois defeitos menores achados junto:

- **`freio_pico_min` (0,12) é código morto**: o freio só engata acima de 0,25 e
  `maior` nasce com esse valor, então `maior >= pico_min` já é verdade no
  primeiro ciclo. O portão nunca atrasa nada.
- **Um limiar só serve de engate E de solta** (`solta_em` nos dois papéis), o
  que torna os dois impossíveis de sintonizar separado.

➡️ **O conserto proposto é abrir mão da realimentação**: contra-torque de
duração calculada no engate (`t_freio = v_ini / a_freio`), aberto, curto. Pelo
bag, o comando de ré entrega ~1,23 m/s² de Δv por segundo comandado, então
0,32 m/s pedem ~0,26 s — **metade** dos 0,44 s que ele fez. **NÃO implementado**
— é redesenho da 038, o dono estava fora da sala, e vai esperar o "pode".

### O que entrou (039)

`rumo_alvo = rumo_carrot − atan2(k·e_lat, max(|v|, v_ref))`, o termo de
Stanley. Ganho escolhido pela dinâmica e não por varredura: o erro decai com
constante de tempo **1/k segundos, independente da velocidade** — e é por isso
que o `v` está no denominador, porque perto da porta o robô anda devagar e um
proporcional puro ficaria fraco justo ali. Com `k=1,0` os 11 cm medidos viram
~1 cm em 3 s (0,90 m de caminho).

11 testes novos, 283 → **294** no `robot_motion`. A lei **nasce neutra**:
`k_lat=0` devolve o rumo do carrot intacto, e é assim que ela vai para a
primeira corrida no robô — mesma regra da 038.

⚠️ **Nenhuma corrida rodou com a lei ligada.** O Gazebo não sobe sem o dono
olhando. A régua já está no lugar: o `path_follower` passou a gravar
`desvio_lateral` no CSV, então a corrida de validação mede o conserto sem
precisar reabrir bag contra mapa.

### Higiene: mais um órfão, e o grep da receita não pega ele

A porta 5000 estava ocupada por um **web de ontem 16:25**, vivo desde a sessão
passada, publicando em `/web_vel` na prioridade 50 do mux. O grep da receita de
limpeza não o encontra: os args dele são só `.venv/bin/python app.py`, que não
casa com `ros2|gz sim|nav2|install`. Terceira vez que órfão custa tempo nesta
casa (07-31 com três pilhas, 13-08 com seis nós).

---

## 2026-08-13 — A BATIDA VIRA FREIO, E O GANHO ESCONDIDO DA CADEIA DE GIRO

> Dev + Gazebo, o dono na tela do começo ao fim. Decisão **038**. Nada foi ao
> robô: a sessão terminou com ele indo para a máquina de verdade.

### Como começou: subir a pilha, e três órfãos do dia anterior

O pedido era simples — "sobe o Gazebo e o serviço web, vou soltar um ponto". A
subida travou duas vezes e o motivo é o de sempre neste projeto: **seis nós
órfãos** de duas tentativas anteriores (`heading_controller`, `path_follower` e
`compensador_rumo`, em triplicata), publicando nos mesmos tópicos. O sintoma foi
`/clock` com **publisher count 0** e o Nav2 inteiro pendurado esperando TF.

Minha checagem de órfãos não os pegou porque eu procurei por `ros2`, `gz sim` e
`nav2` — e os nós nossos rodam por caminho de `install/`, que não casa com
nenhum desses. E depois eu repeti o erro em outra forma: mandei matar a pilha,
o comando saiu com erro, **eu não conferi**, e subi outra por cima. Foi o dono
quem apontou: *"vc tem que matar o outro primeiro, se não da conflito como vc já
viu antes"*.

➡️ Virou `mata_pilha.sh`: mata por PID, **confere**, repete até três vezes, e só
devolve quando a lista está vazia. Verificar não é opcional.

### 1. A batida, e ela estava medida antes de eu propor conserto

O dono mandou um ponto e o robô entrou na porta. A corrida gravada dá o
instante exato: o reflexo cortou o comando a **0,30 m** da parede e o robô ainda
andou **+0,10 m** — parou a 0,20, contra 0,2275 de meia-largura. Encostou.

**O reflexo funcionou.** O que não existia era o freio, e o eixo é o que a 037
deixou de fora. A decisão 038 tem os números; o resumo é que a sobra sem freio
(+0,107 e +0,127 m na bancada) bate com a batida (+0,100 m), e com freio ela cai
para −0,084…+0,018 m.

### 2. O ganho da cadeia — e a minha hipótese errada no caminho

Com o freio de pé ele parou de bater e **continuou dando ré** na porta. Eu disse
ao dono que a causa era o compensador "desligar na curva". Fui ler o código
antes de mexer: **ele não desliga** — o `ff` entra na curva também, e o
comentário no arquivo explica por quê. Quem me enganou foi a mensagem de subida
do nó, desatualizada.

Refazendo a conta com o `ff` somado sobrou uma explicação só, e ela se mede: a
cadeia entrega **~45%** do `wz` pedido. Então o cancelamento do arco chega a 45%
e sobra ≈ −0,12 rad/s de arco permanente — do tamanho exato da curva suave que
sumia. Bancada nova (`ganho_de_giro.py`) confirmou com o teste do modelo
batendo: intercepto medido −0,129 contra −0,099 previsto.

Corrigido, a corrida da porta ficou: **chegou em 30,8 s, zero ré, zero corte do
reflexo**, caminho 1,21x a reta (era 1,40x).

### 3. O que o conserto ABRIU, e ficou aberto

O dono viu na hora: *"não quero essa porra desse S nas retas"*. Medido, a guinada
desperdiçada dobrou (26,9 → 53,5°/m). A causa não é laço rápido demais — o
comando trocou de sinal MENOS vezes que antes. É a lei de rumo `√(2·a_dec·|e|)`
ser íngreme perto de zero: 6° de erro pedem 0,245 rad/s, e a placa varre ~7°
depois do comando zerar. Antes a planta engolia isso; agora ela obedece.

Duas tentativas minhas, as duas falharam, e a segunda ensina mais que a primeira:

- **mira do seguidor 0,30 → 0,55 m**: não mexeu na reta (`|wz|` 0,236 → 0,235) e
  amoleceu a curva (0,346 → 0,226). Knob errado;
- **tolerância de rumo 0,02 → 0,12 rad**: **não chegou ao alvo**, reflexo cortou
  77%. Ele deixou de afinar o rumo na chegada, entrou torto na porta e travou.

➡️ **Reta e porta puxam para lados opostos com um knob global.** Longe e rápido,
tolerar erro ajuda; perto e devagar, tolerar erro cega. Qualquer conserto do S
tem de saber a diferença entre os dois regimes — e nenhum dos knobs que eu mexi
sabe.

A próxima tentativa (`a_dec` 0,3 → 0,10) **não foi rodada**, e por isso o YAML
ficou em 0,3: valor não medido não entra na frente de valor medido.

### O que eu erraria de novo se ninguém anotasse

1. **conferir a limpeza é parte de matar** — duas subidas em cima de órfãos, uma
   delas apontada pelo dono. O script existe agora;
2. **ler o código antes de acusar** — eu propus consertar um "desligamento" que
   não existia. O conserto certo (o ganho) só apareceu depois da leitura;
3. **bancada em espaço apertado mede o aperto** — a primeira varredura do freio
   rodou com o robô encaixado no batente e deu números plausíveis (fase
   comandada de 0,04 m em vez de 0,36). Salvou o diagnóstico ter conferido
   `x,y` de cada linha do CSV;
4. **eu criei um gravador duplicado** escrevendo no MESMO arquivo de outro que
   ainda rodava, e perdi uma corrida boa. Mesmo defeito dos órfãos, em outra
   roupa.

## 2026-08-14 (3ª leva) — O FREIO QUE FOI MEDIDO, E O EIXO ERRADO

> Dev + Gazebo, com o dono na tela. Decisão **037**. A sessão terminou com o
> robô batendo pela segunda vez no dia e o dono encerrando o trabalho.

### O que foi entregue

**O freio de giro por contra-torque existe e está medido.** A máquina não tem
freio — zerar o comando não para nada, a placa segura a saída cheia por 0,52 s.
Medido: comando de 0,6 s dá 3,5° na fase comandada e **60,3° de sobra**, com o
pico de `wz` chegando 0,65 s DEPOIS do corte.

Com contra-torque soltando entre 0,9 e 1,1 rad/s, o giro total cai de **63,8°
para 14–28°**. A lei está em `lei_de_freio.py` (pura, 10 testes) e ligada no
`heading_controller`.

🟢 **E o simulador provou fidelidade nisso**: fase comandada ~3°, sobra 56–68°,
parada em 1,9–2,2 s no robô real de 06-08, contra 3,5° / 60,3° / 1,5 s no
Gazebo. Foi o dono que lembrou que esses dados existiam, e foram eles que
salvaram a análise.

### 🔴 E o que isso NÃO resolveu

Na primeira corrida de navegação com o freio no ar, o robô **bateu**, e o
contador `FREIO:` marcou **zero atuações**.

O motivo é simples e é meu: **o freio é de GIRO e a colisão foi LINEAR.** O robô
ganhou velocidade e entrou na parede ao lado do vão. O dono tinha descrito esse
caso ANTES, com estas palavras — *"se ele ganha velocidade indo reto e tenta
fazer um balão pra passar pela porta, se ele não diminuir essa velocidade ele
vai de cara na porta"* — e eu fui medir e implementar o outro eixo.

**O freio linear não existe.** É o mesmo mecanismo, a mesma bancada, a mesma
forma de medir.

### O que este dia ensina, e vai para o artigo

1. **Geometria não para inércia.** Boa parte do que mexi no polígono do reflexo
   ao longo de 14-08 era tentativa de compensar, com tamanho de caixa, a falta
   de um freio. Cada aumento comprava segurança e vetava manobra; cada
   diminuição destravava manobra e deixava a quina exposta. O eixo certo do
   problema era o atuador, não a geometria.
2. **Instrumento errado produz número plausível.** Foram QUATRO varreduras
   inválidas antes de o freio ficar de pé, e duas delas eu mostrei ao dono como
   resultado. A raiz das duas primeiras: o nó de bancada carimbava relógio de
   PAREDE num mundo em tempo de SIMULAÇÃO — comando descartado por velho, robô
   parado, **nenhum erro na tela**. É o mesmo defeito que derrubou o
   `collision_monitor` de manhã, agora do lado do instrumento.
3. **Medir o mecanismo antes de trocar parâmetro.** O que destravou o freio foi
   gravar o PERFIL do `wz` em vez de continuar varrendo limiar: o pico chega
   0,65 s depois do corte, e eu vinha freando no vazio.
4. **A pergunta que eu devia ter feito primeiro**, e que o dono fez por mim:
   *"não faz sentido ele piorar no Gazebo, fazer na vida real o que no Gazebo ele
   não faz"*. O robô atravessou a porta no prédio em 13-08. Quando a mesma
   configuração falhou no simulador logo cedo, eu tratei como defeito a
   consertar em vez de estranhar o simulador. Tudo que foi sintonizado depois
   disso está apoiado nessa premissa não verificada.

### Armadilha de operação, de novo e pela terceira vez no dia

Limpeza incompleta: **quatro `robot_state_publisher` órfãos** vivos impediram o
Gazebo de subir, e o `bt_navigator` ficou inativo. O sintoma para o dono é
sempre o mesmo — "mando o ponto e nada acontece". Matar por nome não basta
quando há launches empilhadas; é preciso conferir o resultado, e eu conferi
tarde.

## 2026-08-14 (2ª leva) — A BATIDA QUE EU CAUSEI, O FREIO QUE FALTA, E A POSE QUE SALTA

> Dev + Gazebo, com o dono na tela o tempo todo. Decisões **035** e **036**.
> A sessão parou no meio: ele ficou sem tokens. O ponto de retomada está no
> topo do `ESTADO_PROJETO.md`.

### O robô bateu, e a culpa é de uma decisão minha da mesma tarde

Na 033 eu encolhi a caixa do reflexo (frente 0,57 → 0,30) para destravar a
curva, e passei a frenagem para a projeção. Funcionou para o que eu queria e
abriu um buraco que **eu mesmo tinha escrito como dívida na própria decisão**:

```
meia-largura do corpo    0,2275 m
lateral protegida        0,2600 m   <- ok andando reto
MEIA-DIAGONAL do corpo   0,3140 m   <- a quina, fora da caixa
```

Andando reto a quina nunca aparece. **Girando, ela sai.** E girar perto de
parede foi exatamente o que eu destravei. Troquei segurança por mobilidade sem
dizer o preço, e o preço veio com o dono olhando.

⚠️ A lição não é "faltou um número". É que **dívida anotada não é dívida
coberta** — eu segui com o furo documentado como se documentar bastasse.

Conserto (036): a caixa passa a ser o corpo medido + margem **lado a lado**,
frente 0,35 · lateral 0,2775 · traseira 0,2665, quina da frente a 0,447. E o
raio do planejador subiu junto (0,26 → 0,28), senão volta o impasse de um exigir
mais folga do que o outro garante. 🟢 Verificado na tela: **parou em vez de
bater**, no mesmo lugar.

### "Não desista dos goals" — duas tentativas erradas antes da certa

Pedido dele: *"faça essa PORRA desse robô não desistir dos goals, leia como o
robo do Controle_robo_web faz e faça igual"*. As duas primeiras foram remendo de
galho e estão registradas na 035 porque as duas parecem razoáveis:

1. `RecoveryNode(1)` só no `ComputePathToPose` — o planejador falha em RAJADA e
   duas falhas seguidas matavam a árvore igual;
2. `ForceSuccess` no planejamento + `RetryUntilSuccessful` no `FollowPath` — o
   decorador quebrou o halt do cliente de ação (`Failed to get result for
   follow_path in node halt!`). **A tentativa de nunca desistir fez desistir
   mais cedo.**

A peça certa é estrutural e estava no robô 1 o tempo todo: um `RecoveryNode`
com 1000 repetições envolvendo a **navegação inteira**, mais limpeza de costmap
como recuperação. `Spin`, `BackUp` e `Wait` ficam de fora — os três seriam no-op
nesta cadeia, e árvore que acha que recuperou sem nada ter acontecido é o BO-3.

### O pivô voltou, e o quantum virou ferramenta

Ele: *"o pivô ainda faz falta, ele fica fazendo balão... caso o ângulo esteja a
80 graus de erro ele para e faz o pivô e acerta, pro balão poder arrumar"*.

O argumento da 023 continua de pé — a placa entrega um módulo de giro só e a
manobra é um **quantum grosso**, não um controle de ângulo. O que mudou é onde
ela é usada: para erro de 80°+ o quantum É a manobra certa. `limiar_pivo` 3,20 →
1,40 rad, `pivo_max_pulsos` 6 → 1. Medido: **−149° fechados com 3,4° de
resíduo**, num golpe, e zero disparos na rota boa.

### O freio: a ideia dele, medida, e o desenho mudou por causa dos dados DELE

Ele descreveu a física certa: *"ele chega no 90, mas chega rápido, aí solta o
motor, mas a inércia joga ele mais 90 graus"*. Esta máquina **não tem freio** —
zerar comando não para nada. A única forma de tirar energia é torque contrário.

Bancada nova (`tools/banco/freio_de_giro.py`), varredura no Gazebo:

```
contra-pulso   sobra
   0,00 s      40,0°
   0,15 s      24,8°
   0,30 s      19,8°
   0,40 s      13,9°    <- melhora sempre, e NÃO zera
```

E aí ele lembrou que **isso já estava medido na máquina de verdade**
(`docs/dados/2026-08-06-pivo/`), o que resolveu o enigma:

```
             giro    sobra    pico wz    t_parar
liga0.30-a   69,7°   67,7°     1,49      1,94 s
liga0.30-b   67,6°   67,2°     1,52      2,16 s
```

**Quase tudo é sobra** (56–68° de 59–70°), o pico de `wz` chega a 2,5× o
comandado, e ele leva ~1,9 s para parar. Ou seja: o pico de inércia vem **1 a 2
segundos depois do corte**. Meu contra-pulso estava sendo aplicado no instante
em que o robô mal começara a girar — freio no momento errado. Por isso reduz um
terço e não zera.

➡️ O freio certo é **malha fechada sobre o `wz` medido**: contra-torque enquanto
`|wz|` for alto, zero ao cruzar o limiar. O `heading_controller` já tem
`self.wz_real`. Projetado, **não implementado**.

### Onde a sessão parou

O dono viu a pose **saltar no mapa** — *"ele tá enlouquecendo no mapa"* — e
lembrou do conserto do robô 1: a pose só deve andar quando as rodas andam, e na
proporção delas; o casamento do lidar corrige erro pequeno, não teleporta. É o
item nº 1 da próxima sessão, e a primeira coisa a fazer é **medir quem salta**
(AMCL, FAST-LIO ou nada), porque hoje a odometria de roda não entra na pose de
jeito nenhum.

### Regras de trabalho que ele fixou hoje

- **o Gazebo só sobe com ele olhando** — de manhã eu rodei uma dezena de
  corridas sozinho enquanto ele almoçava, e o que ele enxergou na tela em cinco
  minutos (o balão, o 180° no lugar do 90°, o robô colando na parede) nenhum CSV
  meu tinha capturado;
- **RViz não; o serviço web**, que é como ele dirige no robô.

## 2026-08-14 — O DIA EM QUE EU ERREI TRÊS VEZES E O ROBÔ ATRAVESSOU (dev + Gazebo)

> Sessão inteira sem robô: ele passou o dia carregando. Tudo no simulador, com
> o mapa que ele mesmo desenhou em 13-08. Decisões **030 a 034**. Dados em
> `docs/dados/2026-08-14-sim-sala-andar3/` e `.../2026-08-14-sim-porta/`.

### O que o dono pediu, e o que saiu

Ele começou querendo três coisas: parar mais longe das paredes, ir mais devagar,
e entender como o robô se localiza. Terminou o dia com o robô atravessando no
Gazebo o objetivo que travava — três vezes seguidas, sem encostar em nada.

**O caminho até lá foi feito de erros meus, e eles são o conteúdo desta entrada.**

### Erro nº 1 — a margem de frenagem que eu comprei na dimensão errada

O dono: *"ele para muito próximo das paredes e objetos"*. Estava certo, e a
conta provava: o polígono de parada tinha **5,5 mm** de margem sobre a distância
de parada medida — fator de segurança 1,02. Fiz um bico (decisão 030), esticando
só o nariz de 0,49 para 0,57 para não estreitar a porta.

**Treze horas depois, a 033 desfez isso.** A conta da margem estava certa; o
modelo é que estava errado. Numa caixa reta, "margem de frenagem" e "proibição
de curva" são a MESMA dimensão — comprar uma custa a outra, sempre. O bico
comprou 8 cm de margem e pagou vetando manobras de contorno.

### Erro nº 2 — a inflação, duas vezes, em sentidos opostos

O dono previu o impasse antes de ele acontecer: *"se o nav2 achar que passa e o
colision falar que não, ele vai ficar preso"*. Aconteceu exatamente assim.

Subi a inflação de 0,20 para 0,33 para o planejador respeitar o corpo. **Matou a
porta**: bloquear 0,324 proíbe 15,1% das células livres da sala, inclusive
aquela onde o robô está, e o Theta* devolve `Could not generate path`. O dono
viu na hora: *"mandei um goal e nada acontece"*.

Revertido. E aí ele deu o diagnóstico que eu não tinha: *"até no RViz dá para
ver que o desenho do robô claramente não passa onde a linha diz que passa"*.

A causa real só apareceu lendo o `theta_star.hpp`: **o planejador é o Theta\***
(o Smac está aposentado desde 05-08) e ele **não tem footprint nenhum** —
bloqueia célula com custo > 252 e pronto. Daí sai a coisa que eu não tinha
entendido o dia inteiro:

> Com `inflation_radius <= raio inscrito` **não existe faixa graduada**. Célula
> perto é 253, célula longe é 0, e nada no meio. A paisagem de custo é BINÁRIA,
> e um planejador que minimiza distância raspa a borda do proibido.

*"Ir pelo meio"* não era uma preferência que o robô tinha e perdeu — ela nunca
existiu. Decisão 032: raio 0,26 (a faixa útil entre o reflexo e o corpo) e
inflação **0,90**, que é o que cria o gradiente.

### Erro nº 3 — a projeção do reflexo, longa demais pelo mesmo motivo do bico

Com o reflexo já direcional (`approach`), escolhi `time_before_collision` pelo
PIOR comando: 1,8 s. No comando típico isso projeta 0,85 m — 2,4× a distância de
parada — e o robô ficou 30 s parado numa quina que atravessaria. **Repeti o
defeito do bico com outro parâmetro.** 0,75 s, calibrado pelo comando típico,
passou.

### O que o dono acertou, e vale registrar

- **a ré disparando do nada**: *"ontem ela ativava do nada sem nada estar
  acontecendo, e pior, aconteceu no gazebo também"*. Mecanismo: o `/plan` fica
  RETIDO, então 4 s depois de qualquer objetivo morrer o robô parado exibe o
  sintoma de emperramento e recua. Decisão 031;
- **o impasse planejador × reflexo**, previsto de véspera;
- **o balão em vez de curva fechada**: o pivô está desligado por parâmetro desde
  a 023 (`limiar_pivo` 3,20 rad, acima de π — nenhum ângulo dispara), e a lei
  contínua só sabe fazer arco;
- **duas baterias**, não uma. Eu vinha errando isso com base em duas fontes
  erradas do próprio repo (o `DIARIO` de 10-08 e o `CONEXOES.txt`, que é do
  robô 1 inteiro). Corrigido nos dois lugares.

### O que ficou medido

Alvo (6,24 · 3,51), o que ele mandou e que falhava:

```
                            chegou   tempo    cam/reta   reflexo   folga min
como estava de manhã          não      —        1,60x      18%       0,35 m
corridas 1, 2 e 3             SIM   40,4/40,0/39,7 s  ~1,40x  12%    0,35 m
regressão, alvo curto 13-08   SIM     7,0 s     1,00x       0%       0,70 m
```

Folga mínima 0,35 m contra 0,2275 de meia-largura do corpo: **não encostou em
nada**, que é o critério do dono desde 13-08.

### O instrumento que resolveu o dia

`tools/banco/corrida_com_plano.py`, escrito hoje: grava a corrida COM o `/plan`
e calcula, por amostra, o erro de trajeto e a folga até a parede. Foi ele que
matou minha hipótese favorita — eu acusava o seguidor de cortar quina, e ele
mostrou **erro de trajeto p50 de 8 mm, p90 de 6 cm**. O seguidor estava em cima
do plano; quem travava era o reflexo.

⚠️ Lição de método, e ela é geral: passei o dia trocando parâmetro antes de
medir o mecanismo. As três decisões boas do dia (032, 033, 034) saíram todas
DEPOIS de existir um número que separava as hipóteses.

### Armadilhas de operação, de novo

- **Gazebos órfãos.** Três instâncias sobreviveram a launches que falharam, e
  como todas publicam os mesmos tópicos, o `/clock` vinha de uma e a nuvem de
  outra: **314 s de diferença**. O `collision_monitor` recusou a fonte,
  corretamente, e a corrida inteira virou lixo. Com uma instância só: 0,132 s.
  Minha primeira hipótese (sensor simulado pesado demais) estava errada;
- **limpeza incompleta** deixou um `robot_state_publisher` vivo, e os
  controladores do launch seguinte não ativaram (`Switch controller timed out`).
  Sintoma para o dono: "mando o goal e nada acontece";
- launch com `nohup` sem `setsid` morre junto com o timeout da ferramenta.

### O que NÃO foi feito

O `unstuck_supervisor` com giro para o lado livre — o pedido do dono, portado do
robô 1 — **não entrou**. Deixou de ser urgente quando o robô parou de encalhar,
e ele exige um pivô que a placa não sabe fazer com precisão (a manobra é
quantizada em ~95°). O pedido continua de pé e agora tem um desenho: usar o
quantum como manobra grossa de desencalhe, não como controle de rumo.


## 2026-07-14 — Nascimento do repo

- Definido o caráter do projeto: PIBIT, artigo ao final, ritmo devagar,
  decisões embasadas em literatura.
- Repo criado como clone (histórico completo) do `Controle_robo_web` do
  robô 1; remote independente. Racional em `decisoes/000-heranca-do-robo1.md`.
- `MIGRACAO_LIVOX.md` escrito e aprovado pelo dono; demolição executada em
  3 fatias (commits `f406bed`, `fe48a86`, `2945725`), 274 testes verdes.
- Pendências pra próxima sessão: confirmar Ubuntu/ssh da NUC; começar
  ADAPTA 1 (mega_bridge 2 motores) — consultar pinagem da MEGA antes.

## 2026-07-14 (2ª leva) — Arquitetura-alvo + varredura LD06

- Dono definiu o conceito norteador: **GUI 2D pro humano, localização 3D pro
  robô**; nav/localização/movimentação do zero, embasadas — registrado em
  `decisoes/001-gui-2d-localizacao-3d.md`. A "fase 1 clone barato" (stack 2D
  herdada como alvo) foi descartada — teria mascarado a pesquisa.
- Varredura de sobras do robô 1 que a demolição não pegou: encanamento do
  LD06 (test_lidar.sh, lidar.launch.py, retry/watchdog serial do launch.sh,
  passo LiDAR do setup_udev.sh), teleop-pernas, README de 1406 linhas.
  launch.sh ganhou placeholder explícito do Livox (Ethernet) no estágio [3].
- Nenhum código novo escrito (regra: adaptação estrutural apenas).

## 2026-07-15 — ADAPTA 1-2: descoberta que muda o plano (sem MEGA!)

Sessão de investigação pro ADAPTA 1-2 (bridge + cinemática). Nenhum código
escrito — a sessão terminou em correção de premissa, não em implementação.

**O que encontramos no código herdado:**

- `cmd_vel_to_wheels.py` **já é diferencial puro**: L/R por `wheel_base` +
  `linear_scale` + saturação, sem nenhum knob anti-skid (foram removidos
  ainda no robô 1). ADAPTA 2 deixa de ser "reescrever cinemática" e vira
  "calibrar 4 params com o robô": `wheel_base` (bitola real), `linear_scale`,
  `left/right_wheel_sign`.
- Protocolo da placa hoverboard hackeada mapeado a partir de
  `firmware/mega_bridge/{include,src}/hoverboard.{h,cpp}`: família
  NiklasFauth/EFeru FOC — comando `0xABCD | steer i16 | speed i16 | checksum
  XOR` @115200; feedback 18 bytes (`cmd1, cmd2, speedR_meas, speedL_meas,
  batVoltage, boardTemp, cmdLed, checksum`). O firmware da placa tem timeout
  próprio de comandos (motores param se o stream some) — a segurança não
  dependia só do watchdog da MEGA.

**A descoberta (corrige o ESTADO):** o robô 2 **não tem Arduino MEGA** e não
tem nenhuma eletrônica auxiliar (sem relé, LED de marco, botão, IMU externa,
flow). Inventário real: 1 placa hover + rodas, Livox Mid-360, NUC, baterias
(rodas e computador). As rodas chegam "direto no PC" — a forma exata (que
adaptador, que firmware na placa) o dono ainda vai confirmar fisicamente.

**Nota histórica que pesa na decisão:** o docstring do `mega_bridge.py`
registra que ele substituiu um `ros2-hoverboard-driver` que falava direto
com uma única placa — ou seja, o robô 1 COMEÇOU sem MEGA; ela entrou pra
agregar a 2ª placa + IMU + flow + relé, nada do que existe no robô 2.

**Arquiteturas na mesa (decisão 002, pendente de bancada):**

- (A) ponte direta PC↔placa via USB-serial, nó `hoverboard_bridge.py` novo
  falando 0xABCD — sem firmware pra manter; recomendação do assistente;
- (B) reintroduzir uma MEGA como no robô 1 — exige comprar/instalar HW cuja
  razão de ser (agregação de sensores) não existe aqui.

Dono decidiu: **só decidir com a bancada na frente** — inspecionar como as
rodas chegam no PC antes de fechar. Decisão 002 só será redigida depois.

**Checklist da inspeção de bancada (próxima sessão hands-on, robô DESLIGADO
pra inspeção física; LIGADO só se formos ler a serial):**

1. Seguir o cabo das rodas: a placa hover conecta no PC como? USB direto
   (placa já tem conversor?) ou adaptador USB-TTL no meio? Qual chip/modelo
   do adaptador (CP2102, FT232, CH340…)?
2. Placa hover: foto, modelo/marcações da placa, qual conector serial está
   em uso (a UART "sideboard" do firmware hackeado).
3. Firmware gravado na placa: há etiqueta/anotação de quem gravou? Se nada
   indicar, teste vivo: ligar e escutar a serial a 115200 — o firmware
   EFeru/NiklasFauth cospe feedback `0xABCD` continuamente (dá pra confirmar
   com `hexdump` antes de qualquer nó ROS).
4. Nível TTL da UART da placa (3.3 V vs 5 V) — define que adaptador é seguro.
5. NUC: de quebra, confirmar SO (`lsb_release -a`) e habilitar ssh — destrava
   o resto do ESTADO.

## 2026-07-15 (2ª leva) — Meta final, time de 3, rota 2D→LIO

- Dono explicitou a **meta final do projeto**: robô 2 indo de ponto a ponto
  sem bater, igual ao robô 1 — nada além disso. E o contexto novo: o
  trabalho passa a ser de **3 pessoas** (dono ~6 meses de ROS; os outros
  dois nunca mexeram).
- Pergunta que abriu a sessão: "se eu der deploy hoje, o que temos?" —
  resposta mapeada nó a nó: sobe GUI + cadeia de comando inteira, mas o
  `mega_bridge` morre (sem `/dev/mega`) e o Livox é placeholder → painel
  funcionando, robô surdo e paralítico. As duas pontas de HW (BO-1 e driver
  Livox) são exatamente o que falta.
- **Decisão 002** (registro próprio): clone 2D primeiro (receita comprovada
  do robô 1), LIO 3D depois como evolução comparada. Revisa a ORDEM da 001
  mantendo o conceito; racional: com time iniciante e robô inerte, o risco
  dominante virou "nunca chegar ao LIO por falta de base", e o clone 2D é o
  baseline experimental que o artigo precisa de qualquer jeito.
- Escada de marcos M0–M5 registrada no ESTADO; frentes A (base/motores),
  B (percepção/Livox), C (infra/GUI) esboçadas — divisão real e método de
  trabalho a 3 (branches, revisão cruzada) a combinar com o time presente.
- Recomendação pros 2 novatos antes de pegar frente: tutoriais oficiais de
  ROS 2 Jazzy (CLI tools + client libraries, ~2 dias).

## 2026-07-24 — A base sai do papel: tração e localização verificadas

**O que mudou de verdade hoje:** o robô deixou de ser um projeto e passou a ser
uma máquina com base funcionando. Tração e localização foram colocadas de pé e
verificadas em hardware. Isso derrubou as duas incógnitas que travavam o
projeto — registrado na **decisão 003**.

### BO-1 fechado

A placa hover fala **serial direta com o PC**, sem microcontrolador no meio
(`0xABCD` @115200). A candidata B (reintroduzir um MEGA) morre: adicionaria
firmware, latência e ponto de falha para resolver algo já resolvido.

### O erro que mais custou tempo (anotar para não repetir)

O quadro de realimentação da placa tem **18 bytes**, não 26. Com a estrutura
errada o checksum nunca fecha → posição das juntas fica `NaN` → o controlador
rejeita **todo** comando ("non-finite error value") → **as rodas não giram**.
O sintoma é "não funciona" sem nenhum erro que aponte para a serial. O que
isolou isso foi ler a serial crua, fora do ROS, e conferir o checksum no fio.

**Lição de método:** quando a cadeia ROS inteira sobe sem erro e o hardware não
reage, descer abaixo do ROS e olhar o byte. Vale instrumentar isso em CSV.

### Zona-morta do motor

Abaixo de ~`speed 100`/1000 a roda não vence o atrito. A compensação escala as
**duas** rodas juntas até a de maior magnitude cruzar o piso. Escalar cada roda
por si (o jeito óbvio) sobe também a roda interna da curva, destrói a razão
entre elas e o robô **abre** a curva em vez de fechar — o "balão".

### O que NÃO trouxemos, e por quê

A camada de movimentação foi recusada. Não por ajuste ruim: ela empilhava
ganhos multiplicativos em três nós antes do controlador, que tinha teto de
velocidade. O mínimo produzido pela regra "desacelere quando desalinhado" já
saía **acima do teto** — ou seja, o robô andava sempre a fundo, alinhado ou
não, com o giro saturado. Reto a fundo + giro saturado = **anda em S** e não
fecha curva. É exatamente o sintoma que o dono relatou.

A geometria agrava: **motrizes na frente, roda boba atrás**. A traseira só
acompanha por arrasto e amplifica oscilação de rumo (o inverso do carrinho de
supermercado, estável porque a boba vai à frente). Isso passa a ser um dado de
projeto do controlador, não um detalhe.

**Regra que fica:** o controlador de movimentação publica em **SI real** direto
no `diff_drive_controller`, sem escada de ganhos. Limite mora em um lugar só.

### Feito nesta sessão (só arquivo, robô desligado)

- `ros2_packages/hoverboard_driver/` — interface `ros2_control` + diferencial.
  **Compila limpo no Jazzy** nesta máquina (só warnings de API depreciada).
- `ros2_packages/robot_base/` — pacote novo que amarra a base:
  `tracao.launch.py`, `localizacao.launch.py`, `base.launch.py`, e a config de
  rede do Mid-360 versionada (`config/`, com README explicando o porquê).
- `setup_livox.sh` — traz `livox_ros_driver2` e `FAST_LIO` em commits fixados,
  faz o preparo pró-ROS2 do driver, instala a config de rede e compila.

### Percalços do setup (ambos resolvidos e documentados no script)

1. O `livox_ros_driver2` **não embute** o SDK nativo da Livox — exige
   `liblivox_lidar_sdk_shared.so` em `/usr/local/lib`. Sem isso o colcon falha
   com "Could not find LIVOX_LIDAR_SDK_LIBRARY", que não diz o que fazer.
   O script passou a clonar e compilar o SDK.
2. O SDK **não compila no Ubuntu 24.04** (GCC 13): vários headers usam
   `std::uint8_t`/`uint64_t` sem incluir `<cstdint>`, que o GCC 13 deixou de
   puxar transitivamente. Contornado com `-include cstdint` no CMAKE_CXX_FLAGS
   — resolve todos os arquivos de uma vez, sem editar fonte de terceiro.

### Pendências imediatas

- **Instalar o SDK** (`sudo` em `/usr/local`) — único passo que exige o dono;
  a compilação já está feita em `third_party/Livox-SDK2/build`.
- **IP do lidar a confirmar**: já foram vistos dois valores neste robô
  (`.169` e `.158`). Varredura da sub-rede procurando OUI `e4:7a:2c` é a fonte
  da verdade. IP errado = `bind failed` = FAST-LIO sem nuvem = sem `/Odometry`,
  falha silenciosa.
- **Medir `wheel_separation` e `wheel_radius` com trena** — os valores no
  controlador são herdados, não medidos. Erram odometria e conversão de comando.
- **Escrever a movimentação**, que é o objetivo declarado do dono: fazer o robô
  andar direito. Precisa de robô ligado para iterar.

## 2026-07-24 (2ª leva) — Simulador do robô 2

Sem o robô em mãos, montamos o robô 2 no Gazebo para poder ajustar movimentação.
Decisão de projeto em **004**: o simulador só serve se **errar do mesmo jeito
que o robô**. Simulador que anda perfeito faria a gente ajustar contra um robô
que não existe.

### Geometria (informada pelo dono, robô ainda não medido)

Caixa de madeira 0,50 × 0,50 × 0,30, fundo a 0,10 do chão; motrizes de
hoverboard **na frente** separadas por 0,20; boba **no centro da traseira**.
Massa total 10 kg — "ele é leve".

### As três coisas que fazem o simulador não mentir

1. **Boba com trail e atrito no pivô.** O jeito fácil (esfera lisa) não tem
   orientação, então nunca precisa dar meia volta pra acompanhar e nunca empurra
   a traseira. O deslocamento de 4 cm entre eixo do pivô e contato é a **causa
   física** de a traseira sair no giro. Tem teste que falha se isso for zerado.
2. **Pose do chão, não das rodas.** `/Odometry` publica a pose verdadeira do
   Gazebo — mesmo papel do LIO no robô. Odometria de roda reportaria o movimento
   *comandado* e esconderia justamente a derrapada que queremos ver.
3. **Mesma cadeia de controle.** Mesmo `diff_drive_controller`, mesmos tetos de
   velocidade — foi um teto engolindo a modulação que causou o defeito original.
   Só a camada de hardware muda (`gz_ros2_control` no lugar da placa serial).

### Verificado

- URDF válida; 11 testes travam geometria, massa e a concordância entre URDF e
  YAML do controlador. Suíte total: **285 verdes** (274 + 11).
- **Física conferida no Gazebo**: robô inserido no mundo assenta sobre as três
  rodas em z≈0, estável, sem pular nem afundar.

### Onde parou

Não deu pra dirigir o robô ainda: falta `ros-jazzy-gz-ros2-control` (está no
apt, precisa de sudo). Tentei validar a boba aplicando torque de guinada pelo
serviço de wrench do Gazebo, mas o mundo não carrega o plugin que oferece esse
serviço — e adicionar um plugin só pra teste seria muleta, já que o
`gz_ros2_control` é necessário de qualquer forma para o trabalho real.

**Próximo passo:** instalar o pacote, dirigir o robô e conferir se o S aparece.
Se **não** aparecer, o simulador está otimista e os primeiros suspeitos são o
atrito do pivô da boba (baixo demais) e o trail (curto demais) — ambos no bloco
de propriedades no topo da URDF.

## 2026-07-27 — O S deixa de ser sintoma e vira número

Sessão inteira no simulador, usado como instrumento de medida e não como
brinquedo. Entrou o `ros-jazzy-gz-ros2-control` (apt, com sudo), o que
destravou dirigir o robô simulado.

### O defeito reproduzido

Manobra roteirizada: cruzeiro a 0,7 m/s, alvo de rumo 45° a partir de t=2 s,
controlador velho (linear no teto, giro saturado no sinal do erro).

Resultado: **ciclo-limite**, não sobrepasso que decai. Rumo oscilando entre
0,48 e 1,11 rad em torno do alvo — ±18° — com período de 2,8 s, e amplitude
igual do começo ao fim dos 12 s. Em unidades que se comparam de olho com o
robô: serpenteia ±10 cm em torno da reta, e completa um S a cada 1,9 m.

### A causa, com número

O degrau em malha aberta deu a medida: comando de giro cortado com wz=1,0
rad/s, e o robô **girou mais 0,44 rad (25°) depois do corte**. Desses, 0,33
rad são a rampa do limitador (`angular.z.max_acceleration: 1.5` → wz²/2a) e
~0,11 rad são atraso da planta.

Ou seja, existe uma **distância de frenagem de rumo** de ~0,28 rad. Qualquer
controlador que mande giro saturado até o erro trocar de sinal atravessa o
alvo por essa margem, todo ciclo, para sempre. Sobrepasso previsto na
inversão (wz=0,91): 0,276 rad. Medido: 0,34 rad.

**A boba não é a culpada principal.** Comparando odometria de roda com a pose
verdadeira: a roda acha que girou até 0,16 rad a mais durante a curva, e sobra
0,082 rad (4,7°) por curva de 90°. Derrapagem real — o simulador não é
cinemático perfeito — mas responde por ~20% do S. A rampa responde por ~80%.

### A lei candidata

`wz = sinal(e)·min(wz_max, √(2·a_dec·|e|))`, com a linear cedendo em `cos(e)`.
Em uma frase: *nunca peça mais giro do que você consegue frear dentro do erro
que ainda falta*. É a mesma conta do sobrepasso, usada como limite em vez de
sofrida como defeito.

Mesma planta, mesmos tetos, mesma boba, mesma manobra:

| | bang-bang | frenagem |
|---|---|---|
| sobrepasso | 20,5° | 2,4° |
| assenta em | nunca | 1,28 s |
| erro em regime | ±17° eterno | 0,002 rad |

### O dono julgou o simulador fraco — e isso virou estimativa

Mostrado o S animado e em unidades físicas, o dono disse que o robô real faz
"barrigas maiores", da ordem de **50 cm** contra os ±10 cm daqui. Rodando o
mesmo ensaio com a planta degradada (a_dec 0,3 em vez de 1,5) a barriga foi a
~100 cm; a lei de potência entre os dois pontos (barriga ∝ a_dec^-1,43) coloca
o **a_dec real em ~0,5 rad/s²**. Estimativa, não medida — foi o que motivou o
banco de ensaios.

### Estresse: 10 corridas, e o que elas acharam

Tudo na planta degradada (a_dec 0,3, mais pessimista que a estimativa do robô).

| # | estresse | resultado |
|---|---|---|
| E1 | meia-volta 180° | sobrepasso 0,1° |
| E2 | alvo trocando de sinal | 0,1° nos dois trechos |
| E3 | velocidade baixa (0,2 m/s) | 0,1° |
| E4 | malha a 10 Hz (taxa real) | 0,6°, erro final 0,12° |
| E5 | zona morta andando | não mordeu nenhuma amostra |
| E6 | zona morta girando parado | **travado** — é navegação |
| E7 | meia-volta + zona morta 0,10 | soluço de 0,1 s, completou |
| E8 | E7 + piso de linear 0,25 | soluço eliminado |
| E9 | meia-volta + zona morta **0,15** | **22 s parado, erro 179,9°** |
| E10 | E9 + piso 0,30 (fórmula) | sobrepasso 0,8° |

Três achados:

1. **Errar o `a_dec` pra baixo é de graça** (chute 3x menor: sobrepasso zero,
   4,5 s contra 4,8 s do valor exato); pra cima é que traz o S de volta — mas
   mesmo 5x otimista ela **degrada, não quebra**: oscila e decai. É isso que
   autoriza escrever a movimentação antes de medir o robô.
2. **A zona morta é precipício.** Entre 0,10 e 0,15 m/s está a diferença entre
   "funciona" e "nunca sai do lugar". Virou o BO-3.
3. **A regra `cos(e)` zera a linear acima de 90° de erro** — e linear zerada é
   a condição do travamento. Daí o piso de linear, e a fórmula que o dimensiona
   a partir da zona morta.

### Fracassos e correções da sessão (ficam registrados)

- **Dois Gazebos vivos ao mesmo tempo** corromperam uma bateria inteira: o
  tempo andava pra trás no CSV e o rumo dava voltas de 180°. A limpeza matava o
  `gz sim` mas deixava a ponte ROS viva, e cada rodada somava um publicador de
  `/clock` — chegou a **9**. Corrigido com limpeza completa, trava que aborta
  se sobrar processo, e o banco passou a **morrer de propósito** se o relógio
  andar pra trás, em vez de gravar dado sujo.
- **Métrica de sobrepasso errada**: contava a troca de alvo como se fosse
  sobrepasso do controlador (E2 "+90°"). Corrigida para medir por trecho de
  alvo constante.
- **Previsão errada, pega pelo teste**: afirmei que a meia-volta travaria com
  zona morta. Travou 0,1 s e completou com erro 0,0°. Acertei *onde* morde
  (t=5,5 s, o instante previsto pelo log da E1), errei o tamanho. Foi o teste
  de sensibilidade (E9, zona morta 0,15) que mostrou o risco verdadeiro.
- **Superestimei a zona morta no começo**: disse que ela agiria sobre `wz`.
  Ela age sobre a velocidade de cada **roda** — andando a 0,7 m/s as rodas
  estão longe do limiar e ela não morde (E5 confirmou: zero amostras).

### Onde parou

Banco de ensaios versionado em `tools/banco/` (roda igual no robô e no
simulador). O dono foi ao laboratório medir o robô por completo — trena,
zona morta, `a_dec`, curva por velocidade. Com esses números a movimentação
deixa de ter parâmetro chutado dentro.

## 2026-07-27 (2ª leva) — Navegação ponto a ponto

Fatia A da navegação: ir a um ponto, sem obstáculo. Decisão 006.

O dono foi ao laboratório medir o robô e voltou sem medida — a elétrica está
ruim. Não é perda: os parâmetros da movimentação já eram conservadores de
propósito, o nó avisa que não foram medidos, e a lei degrada em vez de
quebrar quando o número está errado. Foi exatamente para este caso que a
propriedade foi verificada de manhã.

### O que a fatia A resolve, e como

Duas ideias, as duas herdadas de coisa medida hoje:

1. **Rumo alvo recalculado todo ciclo** como direção até o ponto. Isso dissolve
   o erro lateral sem controlador extra — o desvio de 66 cm que o controlador
   de rumo sozinho deixava depois de uma meia-volta some, porque não existe
   mais "linha a seguir", existe ponto para o qual apontar.
2. **Aproximação pela mesma lei de frenagem**, agora em distância:
   `v = √(2·a_lin·dist)`. Um parâmetro físico, medível.

E uma forma imposta pela zona morta: **não existe chegar devagarinho**. A
desaceleração ideal manda velocidades cada vez menores, a placa engole as
pequenas, e o robô para longe do ponto achando que chegou — o BO-3 disfarçado
de sucesso. Então a aproximação tem piso e o corte é firme. Consequência que o
nó verifica sozinho: raio de chegada menor que a distância de parada a partir
do piso faria o robô **orbitar o ponto**; ele recusa e avisa.

### Verificado (dois nós reais empilhados no simulador)

| alvo | distância | resultado |
|---|---|---|
| (2, 2) | 2,83 m à frente | parou a **7 mm**, 45 s sem orbitar |
| (−1, 1) | 1,41 m, 135° atrás | parou a **8 mm** |

### O custo que apareceu no segundo caso

Para o alvo atrás, o robô **se afastou até 2,15 m** de um ponto a 1,41 m antes
de voltar: fez um laço. É consequência direta de não pivotar — política que
existe porque girar parado devagar cai na zona morta. Fica registrado como
comportamento conhecido, não como defeito. O laço encolhe quando a zona morta
real for medida, porque é ela que dimensiona o piso, e o piso é o que abre o
arco.

### Fracasso da sessão

A primeira validação mandou o segundo objetivo perto do fim da janela do
observador e não deu tempo de verificar nada — reportei "enviado" sem ter
dado. Refeito com o alvo de trás como primeiro objetivo, aí sim medido.

### Onde parou

Falta a fatia B: desviar de obstáculo. Depende do Livox e de percepção que o
repo não tem. E continuam pendentes as medições do robô (BO-3), agora atrás de
um problema elétrico.

## 2026-07-27 (3ª leva) — Cliques do dono derrubam a navegação

Ligado o RViz à pilha (`/goal_pose`, o nome padrão do ROS — o mesmo fio serve
para a GUI web depois). O dono clicou pontos e **em cinco minutos achou o que
dez corridas roteirizadas não acharam**: um ponto a 0,65 m, de lado, era
orbitado para sempre.

Isso vale como método, não como anedota: os ensaios eram roteirizados por quem
escreveu a lei, e por isso testavam o que ela já sabia fazer — alvos longe,
manobras amplas. Nenhum testava ponto perto e de lado.

### A fronteira estava no log dele

    (3.99, -2.89)  a 4,37 m  -> chegou
    (3.72, -2.20)  a 0,73 m  -> chegou
    (3.15, -1.76)  a 0,65 m  -> NUNCA CHEGOU

### Quatro defeitos, um sintoma

1. **Banda morta com duas saídas.** A roda interna sai dela andando para frente
   OU para trás; só a primeira estava programada. O pivô ficou proibido por
   aritmética, não por física.
2. **Velocidade sem teto pela curva.** Perseguir um ponto a `d` com erro `e`
   exige girar a `v·sen(e)/d`; sem teto, o ponto escapa pelo lado.
3. **A linear cedia pelo erro do BICO.** Este era o principal, e foi o dono que
   apontou: *"não tem como não vencer a velocidade mínima se você estiver
   girando as duas rodas em lados opostos"*. Medido em órbita: bico a **50°**
   do alvo (cos = 0,64 → segue a 64% da velocidade), movimento a **87°** —
   perpendicular. **37,5° de deriva lateral**, constantes. A boba traseira
   sendo jogada para fora, exatamente como a decisão 004 previu; primeira vez
   que ela domina um comportamento em vez de ser detalhe de 20%.
4. **Chegando, não parava.** O rumo até o ponto gira sozinho quando se está em
   cima dele; o robô girava no lugar e o giro arrastava a traseira para fora.

### Depois

| caso | antes | agora |
|---|---|---|
| ponto a 0,65 m de lado | orbitava a 0,233 m para sempre | **chega a 0,059 m** |
| alvo à frente (2, 2) | 7 mm | 9 mm |
| alvo atrás (−1, 1) | 8 mm em 13,5 s, laço de 2,15 m | **8 mm em 9,8 s, laço de 1,67 m** |
| parado no ponto | derivava 0,06 → 0,27 m | **9 mm em 30 s** |

O "laço para alvo atrás", que eu tinha registrado como *custo aceito* na
decisão 006, era sintoma do mesmo defeito. Custo documentado não vira verdade
por estar escrito.

### Meus erros da sessão (o que mais importa aqui)

- **Não olhei o que já estava acontecendo.** O robô orbitava na tela do dono e
  eu fui montar experimento novo — e resetei a pose, apagando o caso dele.
  Reação: *"pq que vc só não viu oq já estava acontecendo"*. O log com os
  cliques já tinha a resposta.
- **Consertei antes de reproduzir.** Diagnostiquei "o piso proíbe o pivô",
  implementei, e só então rodei: a órbita continuou igual. O piso nem estava
  ativo — no simulador `zona_morta = 0`. A hipótese descrevia um bug real (a
  conta estava errada mesmo) mas **não era o bug que o dono viu**.
- **Alimentei o simulador com o chute do robô real.** Lá a zona morta é zero;
  o robô se defendia de um perigo inexistente naquele ambiente. Agora há
  config próprio de simulador, e o banco injeta zona morta quando quer
  testá-la.

### Onde parou

325 testes verdes. Falta a fatia B (desviar de obstáculo, depende do Livox) e
as medições do robô, agora atrás de um problema elétrico — o dono foi ao
laboratório e voltou sem medir.

## 2026-07-27 (4ª leva) — A placa fingida, e a bitola virando o item nº 1

Pedido do dono, e ele estava certo: em vez de rodar o simulador com zona morta
zero (fiel ao Gazebo, infiel ao robô), **colocar a zona morta dentro do
simulador**. Assim o controle é desenvolvido contra ela, e quando a bancada
medir a de verdade troca-se só o número.

- `robot_base/placa_simulada` fica entre o controlador e o simulador e engole
  comando de roda pequeno demais, na roda, que é onde o defeito mora.
- A planta lenta (`a_dec = 0,3`) virou perfil versionado — antes vivia num
  arquivo solto na máquina de quem trabalhava, e quem subisse o simulador pelo
  caminho oficial pegava a planta ágil e veria um robô melhor do que o real.
  Dívida de reprodutibilidade fechada.

### O que a zona morta ligada revelou

O ponto de 0,65 m voltou a ser inalcançável: o robô chega a 0,168 m e não fecha
os últimos 2 cm. **E desta vez não é defeito de código — é física.**

    pivô exige:  wz_max · bitola/2  >=  zona_morta + margem
    bitola 0,20 + zona morta 0,10  ->  precisa de 1,3 rad/s, teto é 1,0  X
    bitola 0,32 + zona morta 0,10  ->  precisa de 0,62 rad/s            OK

**A bitola decide.** O modelo simulado tem 0,20 m, mais estreito que os 0,32
presumidos do robô real — o simulador é mais pessimista que o robô neste ponto
específico. E isso muda a prioridade da bancada: **medir a bitola com trena é
mais urgente do que medir a zona morta**, porque é ela que define se o robô
consegue virar no lugar.

O nó agora anuncia na subida qual dos dois casos é o dele, com o número:

    pivô INDISPONÍVEL: girar parado exigiria mais de 1.30 rad/s, e o teto é
    1.00. O robô só faz arcos, e pontos perto dele ficam INALCANÇÁVEIS.

### Tropeço

`robot_base` não tinha `setup.cfg`, então o executável do nó novo não era
instalado e o launch morria com "libexec directory does not exist". Três
corridas abortadas até eu ler o log do launch em vez do log da corrida.

## 2026-07-28 — A ré entra, e a boba do simulador cai

Sessão que começou numa pergunta do dono sobre a decisão 005 ("ele tá fazendo
ré? pq dando ré ele pode chegar sem problema, não?") e terminou derrubando uma
premissa da decisão 004.

### O que eu prometi medir antes de mexer na lei

A ré resolve o ponto inalcançável por geometria — recuar aumenta `d` e o raio
necessário `d/(2·sen e)` abre. O contra que eu não sabia responder: de ré a
boba vira roda dianteira, e boba na frente é instável. Ficou combinado medir
antes de implementar.

### Erro de ensaio nº 1: reta pura não mede nada

Primeiro ensaio: reta, ida e ré, medindo desvio de rumo. Resultado nos quatro
casos: **0,0° e 0,0 cm em 4 m**, com `y` exatamente zero. O robô simulado é
perfeitamente simétrico num plano liso — ele anda numa reta matemática.
Instabilidade é bifurcação: só aparece se você perturbar. O ensaio `reta` do
banco ganhou um **cutucão** (pulso de giro de 0,5 s e solta) por causa disso.

### Com cutucão: ré ≡ ida, e é aí que a coisa fica suspeita

| | solto com | girou mais | assentou | \|wz\| nos últimos 2 s |
|---|---|---|---|---|
| frente 0,20 | 0,086 rad/s | 1,9° | 0,56 s | 0,000 |
| ré 0,20 | 0,084 | 1,9° | 0,56 s | 0,000 |
| frente 0,35 | 0,086 | 1,9° | 0,56 s | 0,000 |
| ré 0,35 | 0,084 | 1,9° | 0,54 s | 0,000 |

Idênticos demais. Fui olhar o pivô da boba direto no Gazebo (o `/joint_states`
só publica as duas motrizes; o ângulo veio da posição do contato em torno do
pivô, no `dynamic_pose/info`).

### A boba do simulador não é uma boba

Numa curva **pra frente** — v=0,25, wz=0,6, raio 0,42 m — o garfo deveria
assentar a ~157° do corpo, que é `atan(0,18/0,42)` fora do eixo, e ficar lá.
Em vez disso saiu de 180° e girou continuamente até 38°: ele mantém o rumo do
**mundo**, não acompanha o corpo. É um patim, não uma boba.

Hipótese: o `mu2=0.05` da boba (posto de propósito para a traseira derrapar)
matava o torque que alinha o garfo. **Errada.** Multipliquei o atrito por 16
(`mu 0,05 → 0,8`) e o rumo na mesma curva foi de 136,161° para 136,675° —
0,4%. O contato da boba não participa da dinâmica, e a causa real de o garfo
não alinhar continua desconhecida. Arquivo revertido; virou o BO-4.

Isso é maior que a ré: a decisão 004 diz que o trail de 4 cm + atrito no pivô
reproduzem a traseira jogada pra fora, e o S de 27-07 foi atribuído ~20% à
boba. Essa atribuição não se sustenta — a derrapada que o simulador mostra vem
do `mu` baixo do contato, não da geometria de boba.

### Decisão do dono: caminho B

Seguir com a ré conservadora e mandar a boba para a bancada, em vez de caçar a
causa no modelo agora. O simulador só se valida contra os números do robô, que
ainda não temos. Custo assumido e registrado: **a ré foi validada só no
simulador, e justamente a parte que preocupa nela é a que o simulador não pode
mostrar.**

### O que entrou (decisão 007)

Gatilho geométrico (`d/(2·sen e) < raio_min_curva`), ré **reta** por escolha do
dono, sinal negativo em `velocidade_alvo` como modo (sem tópico novo), lei de
rumo intacta (`test_nunca_anda_de_re` continua verde), histerese de 1,3× e
orçamento de 1,0 m / 8 s com grito no log.

Verificado: alvo a 0,65 m de lado, que orbitava a 0,168 m para sempre, agora
recua 9 cm em duas mordidas e **chega** — 0,150 m do ponto, parado 30 s.
Regressão do alvo (2, 2): 8 mm, sem acionar ré. 338 testes verdes (eram 325).

### Erro de ensaio nº 2: dez `/clock` órfãos

Duas corridas de aceitação saíram com o tempo embaralhado e o robô recuando
5 m. Causa: o `trap` do meu script expandia `$NAV` antes da variável existir,
então cada corrida deixava viva a pilha de navegação — e, pior, **dez
`parameter_bridge` de `/clock`** acumulados. Quando um Gazebo novo sobe, todos
voltam a republicar o mesmo `/clock` fora de ordem. O banco tem guarda contra
isso desde 07-27 ("relógio andou pra trás"); minha ferramenta de aceitação,
não. Depois de limpar, refiz a medição de ré e os números bateram com os de
antes — a conclusão não tinha sido contaminada.

Também gastei três chamadas descobrindo que `pkill -f 'gz sim'` casava com a
própria linha de comando do shell que o chamava, e eu me matava.

## 2026-07-28 (2ª leva) — O dono dirigiu, a navegação caiu, o Nav2 entrou

Sessão ao vivo no RViz com o dono clicando objetivos, e o veredito dele em
duas frases: *"essa ré tá uma merda"* e *"ao invés de ele só girar e ir reto,
ele dá um puta balão para chegar num goal do lado"*.

### O que o CSV da sessão mostrou (`docs/dados/2026-07-28-cliques-*.csv`)

2714 amostras, 4 objetivos clicados. O número que resume tudo:
**0 amostras de giro parado**. Ele não virou no próprio eixo uma única vez.

| alvo clicado | distância | caminho andado | tempo | ré |
|---|---|---|---|---|
| (−1,02, −0,33) | 1,07 m | 3,04 m (2,8×) | 9,5 s | nenhuma |
| (−1,58, 0,60) | 0,43 m | 3,66 m (8,5×) | 57 s | 12 entradas |
| (−1,24, 0,23) | 0,40 m | 1,98 m (5,0×) | 60 s | 6 entradas |

Raio de curva efetivo: mediana 0,37 m, mínimo 0,23 m.

**Dois defeitos, e só um era da ré.** O ciclo "ré e anda" tem assinatura de
ciclo-limite: 12 entradas com período de **2,10 s ± 0,54** e mordidas de 5,5 cm.
Causa: a histerese da decisão 007 solta a ré assim que o alvo cabe *naquele
instante*; o robô avança, a distância encurta, a geometria fecha de novo. Eu
validei a ré com UMA geometria e o dono achou o ciclo clicando, de novo.

O balão é outra coisa: é `v/wz` com `wz_max` em 1,0 (herdado, nunca medido) e o
piso de linear que a zona morta obriga — girando a 1,0 rad/s ele é *obrigado* a
andar a 0,23 m/s, e o raio mínimo é isso. Nenhum planner arrumaria.

### O robô 1, lido a pedido do dono

Ele mandou parar de consertar desenho meu e ler o `Controle_robo_web`. Estava
certo. De lá:

- **`path_follower`**: "gira no lugar e anda reto", com histerese (entra a 16°,
  sai a 3°) e saída preditiva do giro. O comentário no código descreve o meu
  defeito de hoje: *"girava e parava no MESMO limiar → limite-ciclo"*.
- **`unstuck_supervisor`**: a ré de lá dispara **por sintoma** ("não se
  deslocou por N s com goal ativo"), é sempre reta, tem orçamento, e mede o vão
  traseiro em METROS num retângulo da largura do robô (`rear_min_gap`) — isso
  nasceu de uma batida de ré real em 11-06-2026.
- **`twist_mux` com prioridade** para humano/desencalhe.
- E um número que me pegou: o robô 1 gira a **2,4–4,5 rad/s**. O nosso teto de
  1,0 é o que torna o pivô "impossível" — e nunca foi medido.

**O dono descartou o "gira no lugar"**: aquilo era a única saída do chassi de 4
rodas, que não faz arco. Este faz curva boa, e não deve parar para virar.

### Decisão do dono: Nav2

Aposentar a navegação ponto a ponto (dados ficam), trazer o Nav2, e por **agora
só o planner** — ver se ele desenha caminho que agrada. Seguidor provavelmente
será nosso, como no robô 1.

### A bancada do planner (`ros2_packages/robot_planning/`)

Dois cliques, dois caminhos, uma tabela. Sem robô, sem simulador, sem sensor —
de propósito: julgar o desenho isolado de quem o executa. Theta\* (o do robô 1)
contra Smac Hybrid-A\* com Reeds-Shepp (respeita raio de curva e pode usar ré).

Pista gerada por `tools/mundo/gera_pista.py`, que escreve **mapa do Nav2 e
mundo do Gazebo da mesma planta**: porta de 0,90 m, bloco solto, aperto de
0,80 m e beco sem saída, com o robô de 0,50 m.

### Três defeitos meus, achados testando a própria bancada

1. **O beco que desenhei era uma caixa lacrada** — sem entrada. Os dois
   planners recusavam o destino, corretamente, e o caso não testava nada.
2. **A medida de raio mínimo estava errada**: eu calculava curvatura entre
   pontos vizinhos de um caminho suavizado a 5 cm, e media ruído de
   arredondamento — acusava 0,01 m num planner configurado com 0,25 m. Corrigido
   reamostrando a 0,20 m.
3. **Preempção silenciosa**: o `planner_server` atende um objetivo por vez, e eu
   pedia os dois caminhos em paralelo. O segundo preemptava o primeiro, e o
   preemptado voltava com **caminho vazio e código de sucesso**. Aparecia como
   "Theta\* sem caminho" só no primeiro clique de cada corrida (frio, ele
   demorava mais e era atropelado). Antes de achar a causa eu culpei o costmap
   e "consertei" uma corrida que não existia.

Seis pares (partida, destino) rodados nos dois planners, todos com caminho.

## 📏 2026-07-29 — A trena no robô: dois números herdados, ambos errados

Primeira vez que o robô 2 é medido. Até hoje **toda** dimensão do modelo era
estimativa ou herança, e o `ESTADO_PROJETO.md` já registrava isso como a dívida
nº 1. O dono passou as medidas; abaixo o que elas derrubaram.

### As medidas

```
caixa .................... 433 × 455 × 145 mm
fundo da caixa ao chão ... 85,2 mm
altura total (sem lidar) . 233,5 mm   (confere: 85,2 + 145 = 230,2; 3,3 mm de tampa)
rodas, por fora .......... 315 mm
rodas, por dentro ........ 225 mm
diâmetro da roda ......... 160 mm
ponta da roda → frente ... 55 mm
```

Da terceira e quarta linha saem dois números de uma vez, sem medir nenhum
outro: bitola = (315+225)/2 = **270 mm**, espessura da roda = (315−225)/2 =
**45 mm**.

### O achado: a bitola errava dos DOIS lados, em sentidos opostos

O `hoverboard_controllers_sim.yaml` carregava um bloco `⚠️ DIVERGÊNCIA
CONHECIDA` escrito à mão: simulador com 0,20, robô real com 0,32, nenhum dos
dois medido. A trena diz 0,270 — **nenhum dos dois acertou**, e o efeito é em
direções contrárias:

| | bitola usada | giro real vs comandado |
|---|---|---|
| Simulador | 0,20 | gira **26% a menos** (90° → 67°) |
| Robô real | 0,32 | gira **19% a mais** (90° → 107°) |

Ou seja: sintonizar o controlador de rumo na bancada e mandar pro robô erraria
duas vezes, em sentidos opostos. É a pior forma de erro possível — a bancada
teria parecido boa e o robô teria piorado. Não é hipótese: era o estado do repo
até hoje de manhã.

O raio caiu junto: 0,0825 (roda de 6,5" nominal, herdado) → **0,080** medido.
Sozinho ele é ~3% de erro de odometria — 30 cm a cada 10 m percorridos.

### O eixo estava 68,5 mm à frente de onde está

Dos 55 mm entre a ponta da roda e a face frontal: face em 0,2165, ponta em
0,1615, centro do eixo em **0,0815** — contra 0,15 estimado. O entre-eixos
(eixo motriz → pivô da boba) cai de 0,330 para 0,2615, **21% menor**. Importa
direto: a traseira é uma ponta solta mais curta do que vínhamos simulando, com
menos vantagem mecânica pra jogar a boba pra fora.

### Defeito achado conferindo: o chassi tinha massa no chão

O `<inertial>` do `base_link` não tinha `<origin>`. Sem ele o URDF assume
`(0,0,0)`, e a origem do `base_link` está **no nível do solo**. A caixa era
desenhada a 85–230 mm e os 5,8 kg eram simulados a 0 mm.

```
CoM do robô, antes ....... z = 0,0173 m
CoM do robô, corrigido ... z = 0,1244 m     (7,2× mais alto)
```

O simulador rodava com uma panqueca colada no chão: sem rolagem e — o que
importa aqui — **sem transferência de peso**. É o mecanismo central do problema
que estudamos: ao acelerar, o peso sai da traseira, a boba fica leve, perde
força normal e **escorrega mais de lado**. Com a massa no solo esse mecanismo
simplesmente não existia; a carga na boba era constante o tempo todo.

Delimitando o estrago, porque ele não é total: o deslocamento é só em Z, e
inércia de guinada (`izz`) não muda com deslocamento vertical. **A inércia de
rumo estava certa** — o trabalho de oscilação de rumo feito na bancada continua
válido. Errado estava rolagem, arfagem e transferência de peso.

### A boba do modelo era geometricamente impossível

`boba_raio` valia 0,05 — roda de **100 mm**. Mas o vão inteiro sob a caixa é de
**85,2 mm**, e a boba precisa caber ali com chapa, pivô e garfo. A roda sozinha
era mais alta que o conjunto todo. O valor morreu por restrição, sem precisar de
medida nova: o robô estar reto a 85,2 mm já prova que ele é falso.

Provisórios que entraram, escolhidos para serem POSSÍVEIS (não medidos):
`boba_raio` 0,025 (roda de ~2", descontando o ferro) e `boba_trail` 0,01
(15–25% do diâmetro é o típico). O trail anterior de 0,04 **exagerava em 4×** o
quanto a boba é jogada pra fora. Modelo que exagera o defeito engana tanto
quanto modelo que o esconde.

### O teste do trail reprovou o valor certo

`test_boba_tem_trail_nao_nulo` exigia trail > 10 mm fixos, e o novo valor é
exatamente 10 mm. O teste fez o trabalho dele — ele existe pra impedir que
alguém zere o trail e transforme o simulador num robô ideal. Mas o piso de 10 mm
foi escrito quando o modelo supunha roda de 100 mm: nessa escala 10 mm é
desprezível. Numa roda de 50 mm, 10 mm é o valor **típico**, e o piso absoluto
reprovava justamente o número correto.

Corrigido para limite **relativo**: `trail > 0,2 · raio_da_roda`. Preserva a
intenção e vale em qualquer tamanho. Não subimos o trail pra passar no teste —
seria ajustar o robô pra agradar o teste.

### O pivô continua indefinido, e agora depende da zona morta

O `ESTADO_PROJETO.md` registrava que a bitola decidia se o robô consegue
pivotar. Reescalando os dois casos já calculados para a bitola medida:

| caso | wz p/ pivotar (bitola suposta) | com bitola 0,270 |
|---|---|---|
| simulador (zona morta 0,10) | 1,30 rad/s | **0,96 rad/s** — cabe no teto de 1,0, com 4% de folga |
| robô real (zona morta 0,15) | 1,25 rad/s | **1,48 rad/s** — impossível, e PIOR que antes |

A bitola medida **não resolveu a pergunta**: ela caiu entre os dois palpites, e
agora quem decide é a **zona morta**, que segue sem medir. Com 4% de folga no
melhor caso, isso não é margem nenhuma. A zona morta virou o item nº 1 da
bancada, no lugar da bitola.

### Estado

282 testes verdes. Ainda **não medidos**: diâmetro da rodinha da boba (fecha
`boba_raio` e `boba_trail` de uma vez), massas, e a largura da caixa **na altura
das rodas** — as rodas ficam 70 mm para dentro da parede lateral, então ou a
caixa tem recortes ou a parte de baixo é mais estreita que os 455 mm do topo.
Não afeta giro nem odometria; afeta o footprint que o Nav2 usa pra decidir se
passa num vão.

Em aberto com o dono: trocar a boba por uma **roda omnidirecional**. Não é
contornar o problema — omni não tem pivô nem trail, então elimina a causa da
instabilidade de rumo em vez de mascará-la. Mas invalida a junta de pivô, o
trail, o atrito de pivô e boa parte do `robo2.gazebo.xacro`. Se for pra frente,
é decisão registrada, não ajuste.

## 🎯 2026-07-29 (2ª leva) — A pilha inteira obedece; o giro é que não entrega

Com a trena já dentro dos YAMLs, faltava a pergunta que a manhã não respondeu:
**a pilha montada obedece?** O `ensaio.py` mede a máquina em malha aberta e roda
igual no robô; ele não diz nada sobre navegação + movimentação + placa
empilhadas. Daí `tools/banco/corrida_gazebo.py`: sobe o Gazebo headless, roda
duas fases na MESMA simulação e derruba tudo. Duas corridas, uma por perfil de
zona morta (`sim` 0,10 · `real` 0,15) — o chute otimista e o pessimista, postos
nos dois lados (planta E controlador), porque pôr o pessimista só no controlador
mede uma máquina que não existe.

232 mil amostras nos dois CSV de `docs/dados/`.

### Fase B: os 5 alvos fecharam, nos dois perfis

Reta de 2 m, 90° de lado, 180° para trás, o ponto perto-e-de-lado (o caso da
decisão 007) e a volta à origem. **10 de 10 chegaram** dentro do raio de 0,15 m.
Nenhuma órbita, nenhum travamento — contra a sessão de 28-07, em que o dono
clicando derrubou a navegação com 0 amostras de giro parado em 2714.

Isso não é a navegação absolvida: ela segue aposentada. É a constatação de que
o roteiro fechado não reproduz o defeito que o dono achou clicando — mais uma
vez, e o registro de 27-07 já dizia o mesmo (10 corridas roteirizadas não
acharam o que 5 minutos de clique acharam).

### Fase A: a reta sai exata, o giro sai curto — e piora subindo

A fase A publica **direto** no controlador de tração, contornando a placa
fingida: sem zona morta no caminho, o que sobra é a conversão comando→roda mais
a física. O controlador de rumo nem está no ar.

| comando | realizado ÷ comandado |
|---|---|
| reta v=0,30 | **1,004** |
| giro 0,3 rad/s | 0,860 |
| giro ±0,5 rad/s | 0,855 / 0,853 |
| giro 0,8 rad/s | 0,786 |
| giro 1,0 rad/s | **0,790** |
| arco v=0,3 wz=0,4 | 0,941 |

A varredura de wz existia para separar RAZÃO de OFFSET, e a resposta é **razão,
e agravando**: o teto de `wz_max = 1,0` entrega **0,79 rad/s de verdade**. Não é
a bitola errada — bitola errada daria razão CONSTANTE, e a reta a 100,4% já
prova que raio e conversão estão certos. O que degrada com a velocidade é
escorregamento.

Esquerda e direita batem em 0,2% (0,855 × 0,853): não há assimetria de
conversão. Some a isso um recuo sistemático de ~0,065 m/s por rad/s **girando
parado**, igual nos dois sentidos. Parte é geometria de medida — a origem do
`base_link` está 81,5 mm atrás do eixo motriz, então ela orbita quando o robô
pivota — mas o efeito de geometria trocaria de sinal com o sentido do giro, e
este não troca. Fica anotado, sem explicação fechada.

⚠️ **Tudo isso é o Gazebo com a boba do BO-4**, que já sabemos ser um patim. O
déficit de giro pode ser o mesmo contato falso. Não vale como medida do robô.

### O pivô só existe no perfil otimista — de novo, e agora medido

181 amostras de giro parado no `lado_90` do perfil `sim`; **zero em toda a fase
B do perfil `real`**. Bate na mosca com a aritmética de hoje de manhã: 0,96 rad/s
para pivotar com zona morta 0,10 (cabe no teto, 4% de folga), 1,48 rad/s com
0,15 (impossível). Sem pivô, o `lado_90` do perfil real custou 2,43 m de caminho
e 151,6° líquidos para uma virada de 90°.

### O piso de linear segura o BO-3

**Zero amostras** com roda pedida dentro da banda morta, em todos os trechos dos
dois perfis. A defesa `v_piso = zona_morta + wz_max·bitola/2 + margem` está
fazendo o que foi desenhada para fazer.

### O ciclo "ré e anda" voltou, e só no perfil pessimista

O alvo `perto_de_lado` (0,40 m de distância):

| | tempo | caminho | caminho ÷ reta | entradas em ré |
|---|---|---|---|---|
| perfil sim | 2,7 s | 0,54 m | 2,20 | 2 |
| perfil real | **9,2 s** | **1,85 m** | **7,19** | **5** (período 2,23 s) |

É o mesmo defeito de histerese diagnosticado em 28-07, com período quase igual
(2,23 s contra 2,10 s). Ele sobrevive porque quem roda nesta bancada ainda é o
`goal_navigator`. **Não vamos consertá-lo**: a camada está aposentada, e o
trabalho iria para o lixo junto com ela.

### O que isto muda no trabalho de amanhã: um número da bancada do planner

`bancada_planner.yaml` está com `minimum_turning_radius: 0.25`, justificado no
comentário por "a curva mais fechada no simulador em 28-07 foi 0,23 m". Esta
corrida contradiz:

| | raio que o controlador PEDE | raio REALIZADO (p5) |
|---|---|---|
| perfil sim | 0,270 m | **0,370 m** |
| perfil real | 0,339 m | **0,463 m** |

(os mínimos absolutos de 0,14 e 0,20 m são transitórios de uma amostra, não
curva sustentada — por isso o p5.)

O realizado abre em relação ao pedido **por causa do déficit de giro**: pede-se
1,0 rad/s, sai 0,79, e o raio abre na mesma proporção. No perfil pessimista o
planner está configurado com quase METADE do raio que a máquina fecha.

Isso não é um parâmetro qualquer nessa bancada: o raio mínimo **é** o argumento
da comparação. O Smac Hybrid-A\* está na mesa contra o Theta\* precisamente
porque respeita raio de curva. Julgar os dois com um raio 1,9× otimista é dar a
vitória ao Smac num robô que não existe — a mesma forma de erro da bitola, em
que a bancada pareceria boa e o robô pioraria.

**Decidido em vez de chutar de novo**: a bancada do planner roda com uma FAIXA
de raio, não com um valor. Se o ranking não virar com o raio, a conclusão está
imune à zona morta que ainda não medimos e a decisão 008 pode ser assinada já.
Se virar, descobrimos antes de assinar — e o item nº 1 da bancada com o robô
ganha uma segunda razão de peso.

## 📐 2026-07-29 (3ª leva) — A régua da bancada estava errada; consertada, o planner se decide

A corrida da manhã reabriu o `minimum_turning_radius` da bancada do planner: os
0,25 m configurados contra 0,370 m e 0,463 m de raio realizado, um por perfil de
zona morta. Como o número certo depende de uma medida que só o robô dá, o jeito
honesto não era escolher — era **varrer**. Daí
`tools/planner/varredura_raio.py`: 6 casos × 4 raios × 2 planners, headless,
sem cliques.

E a varredura achou um defeito antes de responder a pergunta.

### O caminho estava certo; a régua, não

Na primeira rodada o Smac apareceu devolvendo, com raio de 0,46 m configurado,
um caminho de **raio 0,125 m** — 3,7× mais fechado do que ele foi mandado
respeitar. Isso é grave: o Smac está na disputa exatamente por respeitar raio.

Reproduzido e desmontado antes de consertar nada:

1. **Não é o suavizador.** `smooth_path` ligado e desligado dão caminho
   idêntico, ponto por ponto.
2. **Não é o planner.** Despejados os 20 pontos crus do caso `perto_de_lado`,
   com o deslocamento projetado no rumo de cada pose, o sinal aparece: `+0,072`
   nos pontos 1–3, **`−0,072` nos pontos 5–16**, `+0,072` nos 17–19. O caminho
   é *frente, ré por 0,86 m, frente* — duas **cúspides** de Reeds-Shepp. Os
   arcos fecham ~0,41 m, dentro da discretização dos 0,46 pedidos.
3. **É o `mede()`.** Ajustar círculo por três pontos EM CIMA da cúspide lê a
   dobra como curva fechadíssima; e a reamostragem a 0,20 m pula por cima da
   dobra, então a inversão sumia. As três colunas erravam de uma vez:

| | relatado | verdade |
|---|---|---|
| raio mínimo | 0,125 m | ~0,41 m |
| giro | 181° | ~72° (o resto é a inversão) |
| inversões | **0** | **2** |

E erravam todas na mesma direção: **contra quem usa ré**. A bancada estava cega
justamente no assunto que ela existe para julgar. Ela não tinha teste nenhum —
foi assim que sobreviveu.

**Conserto**: o caminho é partido nas cúspides (detectadas nos pontos CRUS) e
cada trecho é medido sozinho; `inversoes` passa a ser a contagem de cúspides.
Cinco testes novos em `test_mede.py`, com a geometria tirada do caminho real,
não inventada para passar.

### Um segundo número impossível, e um achado de verdade dentro dele

Consertada a cúspide, o caso `bloco` com raio 0,46 passou a acusar
`raio_min = 0,00 m`. Despejado o caminho: 69 pontos, dos quais **63 formam
4,86 m limpos** e os 6 últimos são um **tremor em cima do alvo** — 4 inversões
dentro de uma caixa de 9 cm, deixando trechos de 8 cm entre cúspides.

São duas coisas, e separá-las importa:

- o `0,00` era da régua (um fallback que media curvatura nos pontos crus quando
  o trecho era curto demais para reamostrar — exatamente o ruído que a
  reamostragem existe para evitar). Trecho curto agora é **pulado e contado** na
  coluna nova `curt`, porque pular calado é como o defeito anterior durou tanto;
- **o tremor é do planner e é achado**: com raio grande, a aproximação final do
  Smac não assenta no alvo e fica trocando de sentido. Fica registrado para o
  seguidor — quem for executar isso precisa saber.

### Com a régua honesta: o ranking não vira, ele se acentua

288 → 289 testes verdes, e a varredura rodada de novo. O Theta\* saiu
**idêntico nos quatro raios** — ele não conhece raio, e é a testemunha de que a
varredura mexeu só no que devia.

| raio que a máquina fecha | Theta\*: caminhos seguíveis | Smac: idem |
|---|---|---|
| 0,25 m | 4/6 | 6/6 |
| 0,34 m | 3/6 | 5/6 |
| 0,37 m | 3/6 | 6/6 |
| 0,46 m | **0/6** | 6/6 |

O Theta\* desenha sempre o mesmo caminho; quem se move é a linha que ele precisa
cruzar. Os raios dos caminhos dele são 0,28 m (`aperto`) e 0,37–0,39 m nos
demais — com a máquina fechando 0,46 m, **nenhum** é seguível. E nos dois casos
"de lado" ele falha em qualquer raio, por outro motivo: desenha reta lateral,
que só serve para robô que pivota, e este não pivota com a zona morta
pessimista (medido hoje de manhã: zero amostras de giro parado).

O Smac cobra por isso, e o preço sobe com o raio: no alvo perto e de lado, de
1,50× para **2,12×** a linha reta. É o custo de desenhar só o que a máquina faz.

**A consequência prática é boa**: a decisão 008 **pode ser assinada sem esperar
a zona morta**. A medida que falta muda o tamanho da vantagem, não quem vence.
Era exatamente o que a varredura foi feita para descobrir.

### O que ficou por consertar, de propósito

O `giro` de um arco contínuo sai **curto** — 90° são medidos como 50°. A causa é
a mesma reamostragem: as meias-viradas das duas pontas não têm vértice onde
aparecer. Não foi corrigido junto com a cúspide porque os dois viéses puxam para
lados CONTRÁRIOS na mesma coluna, e consertar os dois na mesma mudança tornaria
impossível saber qual moveu qual número. Fica travado num teste que diz o que
está errado e por quê.

## 🧭 2026-07-29 (4ª leva) — O viés do giro, e os dois defeitos que estavam escondidos atrás dele

Ficou pendente da leva anterior: o `giro` de arco contínuo saía curto (90° lidos
como 50°), e o erro não era parelho entre os planners — o canto vivo do Theta\*
tem vértice e era contado inteiro, enquanto o arco do Smac perdia nas duas
pontas. A coluna que mede "quanto ele mexe o bico" **favorecia o Smac na
comparação que ela arbitra**, e o dono ia julgar com ela.

### Primeiro, a premissa da reamostragem caiu

Antes de somar no cru, fui ver se o passo cru é ruidoso, que era a justificativa
escrita da reamostragem a 0,20 m. Medido em três casos:

```
Theta*    passo 0,0500 m (a resolução do mapa)  virada MEDIANA 0,00°
Smac      passo 0,086 m                          virada MÁXIMA  19,9°
```

Os 19,9° com passo de 0,086 dão raio 0,249 m — o teto configurado, não ruído. A
justificativa antiga ("três pontos vizinhos medem ruído de arredondamento") não
se sustenta: o 0,01 m que ela dizia consertar era a cúspide de 28-07. O giro
passou a ser somado nos pontos crus.

### Aí a varredura começou a devolver 447° num caminho de 1,19 m

Somar no cru expôs dois defeitos que a reamostragem vinha escondendo — os dois
achados olhando o caminho, não adivinhando.

**1. Tocos de ponta.** O planner cola a pose exata de partida e de chegada no
caminho discretizado, e sobra um segmento de **7,7 mm** em cada extremidade,
fora do arco. Direção tirada de um toco desses é lixo: cada um injetava ±125,6°.
Corrigido costurando fora os segmentos abaixo de metade do passo típico do
caminho — limite relativo, porque o passo do Theta\* (0,05) e o do Smac (~0,08)
são diferentes e um número fixo serviria a um só. **O comprimento não muda**: o
robô percorre o toco, ele só não define rumo.

**2. Cúspide rasa, e o detector geométrico não a via.** Sobravam 437°. A pose
resolveu em uma linha — projetando cada passo no rumo da pose, o caminho
`lado_1m` é `+----------------+`: **um passo à frente, 16 de ré, um à frente**.
Duas cúspides, que a dobra geométrica mede como 147° e passavam por baixo do
limiar de 150°. Eram elas nos 437°.

A detecção passou a usar a **pose** quando o caminho traz orientação, e a
geometria quando não traz — porque o Theta\* devolve o caminho inteiro com
orientação zerada (faixa de yaw de **0,0° em 144 pontos**, medido). Não custa
nada: planner só-para-frente não tem cúspide para achar.

```
lado_1m @0.25    antes: giro 437°  inv 0  raio 0,32
                depois: giro 144°  inv 2  raio 0,28   (o teto é 0,25)
```

### O veredito não mudou, e agora a coluna do giro serve

Seguibilidade idêntica à da leva anterior — ela sai do `raio_min`, que não foi
tocado: Theta\* 4/6 · 3/6 · 3/6 · **0/6** contra Smac 6/6 · 5/6 · 6/6 · 6/6. O
que mudou é que dá para ler o giro:

| caso | Theta\* (fixo) | Smac (faixa) |
|---|---|---|
| porta | 192° | 144–247° |
| bloco | 153° | 218–304° |
| aperto | 271° | 320–465° |
| beco | 132° | 212–279° |
| perto_de_lado | **0°** | 122–131° |
| lado_1m | **0°** | 144–188° |

O Smac mexe mais o bico em todos os casos com obstáculo — é o que custa curvar
em vez de pivotar, e agora está medido em vez de subestimado. E os dois zeros do
Theta\* nos casos "de lado" não são virtude: ele desenha reta lateral, giro zero,
para um robô que teria de pivotar — e este não pivota.

Também apareceu que a **ré do Reeds-Shepp é constante nos casos de lado**: 2
inversões em todos os quatro raios, nos dois. Era invisível antes.

294 testes verdes (eram 289), 5 novos.

### O que fica por consertar, de novo de propósito

O levantamento expôs um problema no `raio_min` que **não** foi mexido nesta
mudança: a reamostragem a 0,20 m passa por cima do canto vivo do Theta\* e
devolve 0,37–0,39 m onde a virada é um canto — curvatura infinita, que robô sem
pivô não segue de jeito nenhum. Ou seja, o raio faz o Theta\* parecer **mais**
seguível do que ele é, e o veredito de hoje é conservador, não otimista.
Distinguir canto de arco é a próxima correção da régua — e ela só pode
melhorar o lado do Smac.

## ⚖️ 2026-07-29 (5ª leva) — A decisão 008, escrita com os 48 planos na mesa

Fechada a régua, escrevi `docs/decisoes/008-nav2-planeja-nos-seguimos.md` em
estado **proposta**: ela recomenda, e o dono aprova ou derruba lendo. O que ela
decide, e sobre que número:

1. **Planner global = Smac Hybrid-A\*, em Reeds-Shepp.** É o único seguível em
   toda a faixa de raio plausível (6/6 · 5/6 · 6/6 · 6/6 contra 4/6 · 3/6 ·
   3/6 · **0/6**). A vantagem não depende da zona morta que falta: o ranking não
   vira entre os extremos, ele se acentua.
2. **O Theta\* sai, e não é por ser ruim.** Ele é o planner do robô 1 e lá
   funciona *porque* aquele chassi só sabe girar parado. Aqui ele desenha reta
   lateral com giro zero para um robô que teria de pivotar — e este não pivota.
   Herdá-lo seria herdar a solução do problema do outro robô, que é exatamente o
   que a decisão 000 mandou não fazer.
3. **A ré passa a nascer do planejamento** (revisa a 007). A histerese da 007 foi
   reprovada duas vezes com dado: 28-07 no clique do dono e 29-07 na bancada
   (5 entradas em ré, 1,85 m de caminho para um alvo a 0,40 m). Com Reeds-Shepp
   o caminho inteiro já sabe onde a ré entra — medido: 2 inversões nos casos de
   lado, nos quatro raios, consistente e não oportunista.
4. **O seguidor é nosso**, com a movimentação da decisão 005 por baixo. Trocá-la
   por um controlador do Nav2 seria jogar fora a única camada com física medida
   para ganhar ganhos a sintonizar do zero, contra um simulador que ainda tem a
   boba do BO-4.

Quatro alternativas ficaram registradas como descartadas, com o motivo: manter
o Theta\* e resolver na movimentação (já tentado — foram as decisões 006 e 007,
as duas reprovadas), usar o seguidor do Nav2 agora (reavaliável depois, e aí
vira o BO-2), Smac Lattice (precisa das primitivas, que precisam dos números que
não temos) e escolher um raio só (repetiria a forma de erro da bitola).

### O que a 008 explicitamente NÃO resolve

A bancada desenha, não dirige — se o robô consegue seguir o caminho só fecha com
o seguidor de pé. O costmap ainda vem de mapa estático, porque o robô simulado
não tem lidar. E fica anotado o tremor do Smac em cima do alvo com raio grande
(4 inversões numa caixa de 9 cm no `bloco` com 0,46 m), que é achado medido e
cai no colo do seguidor.

## 🥕 2026-07-29 (6ª leva) — Seguidor, fatia A: a lei, sem ROS

Decisão 008 aceita pelo dono, e a fatia grande que ela destrava começou.
`robot_motion/lei_de_seguimento.py` — pura, sem ROS, testável sozinha, mesma
forma da `lei_de_rumo.py` e pelo mesmo motivo: o que decide o comportamento do
robô tem que poder ser exercitado sem subir simulador nenhum.

### A arquitetura, fechada com o dono

```
GUI → /goal_pose → bt_navigator → planner_server (Smac) → /plan → seguidor
                                                                     ↓
                                          rumo_alvo + velocidade_alvo
                                                                     ↓
                                      heading_controller → cmd_vel → rodas
```

Quem pede o plano é a **GUI**, e o **replanejamento vem de graça** com o
`bt_navigator` — eu tinha suposto que precisaria de uma fatia própria e não
precisa. O seguidor só ouve `/plan` e produz dois números.

A divisão de responsabilidade fica explícita: o Nav2 diz POR ONDE, esta lei diz
PARA ONDE OLHAR e QUÃO RÁPIDO, e a `lei_de_rumo` diz O QUE O ATUADOR AGUENTA.
A lei de seguimento **não conhece zona morta nem `a_dec`** e não fala com roda —
essa camada já está caracterizada e não se duplica.

### Os três números, cada um de um defeito medido

1. **Carrot** — mira um ponto à frente NO CAMINHO, medido pelo **arco**, não
   pela linha reta. Pela reta o robô corta a curva por dentro e raspa a quina
   do vão em vez de seguir a forma que o planner desenhou.
2. **Lookahead derivado do raio mínimo** (`max(piso, 1,5 · raio_min)`), não
   escolhido. É o parâmetro central deste nó, e número solto aqui viraria mais
   um valor herdado sem justificativa — como a bitola 0,32 e o raio de roda
   0,0825, que chegaram errados até a trena. Amarrado ao raio, ele acompanha a
   máquina quando a zona morta for medida. O piso existe porque carrot colado
   no robô faz o rumo alvo oscilar com ruído de pose: é o S de 27-07 entrando
   por outra porta.
3. **Teto de velocidade pela curva** — o defeito nº 2 de 28-07, o balão.
   `raio = v/wz`: com o giro e a linear nos tetos, o robô é OBRIGADO a descrever
   um arco de `v/wz_max`, e foi assim que um alvo a 0,43 m custou 3,66 m. A
   linear cede para a curva caber. E a curvatura é olhada numa **janela à
   frente**, não no ponto atual: a máquina tem distância de frenagem, então
   frear em cima da curva é frear tarde.

### O teste que passou de primeira e estava mentindo

Os 11 testes passaram na primeira execução, o que é suspeito. Rodei mutação —
quebrar a lei de propósito e ver se algum teste reclama. **O do carrot não
reclamou**: o arco de 90° que eu usara é curto demais para a corda e o
comprimento divergirem, e a tolerância estava larga. Trocado por arco de 180°
com passo fino, as duas contas separam (0,69 contra 0,78) e o teste passou a
morder.

Uma armadilha custou tempo e fica anotada: `build/robot_motion/robot_motion` é
**symlink para o fonte**, e o `__pycache__` sobrevivia à restauração do arquivo.
O teste de mutação mentiu duas vezes por causa disso — o fonte já estava
restaurado e o comportamento ainda era o da mutação. Toda rodada de mutação
limpa o cache antes.

Refeito limpo: **5 mutações, 5 pegas**, cada uma por exatamente um teste.

305 testes verdes (eram 294). Fatia B (cúspides e ré) e C (chegada e guarda do
tremor do Smac) vêm depois.

## 🔙 2026-07-29 (7ª leva) — A ré volta a ser por gatilho (decisão 009), e a fatia B

Horas depois de a decisão 008 dizer que a ré nasceria do planejamento, o dono
derrubou essa seção com razão de campo: **ré planejada em robô com Nav2 é
problemática — o robô fica tentando entrar e seguir os trechos de ré.** Foi por
isso que ele tirou a ré do planejamento no robô 1 e criou lá a ré por gatilho.

Não dava para arbitrar com a bancada: ela desenha, não dirige. O que dava era
medir o custo de cada saída, e foi o que se fez antes de decidir.

### Três medições, e uma hipótese minha que caiu

**1. Encarecer a ré não a elimina.** `reverse_penalty` de 2 → 10 → 40, no raio de
produção: as inversões ficam onde estavam (porta 2, perto_de_lado 2, lado_1m 2,
bloco 3→4→2). Nesses casos a ré é geometricamente necessária, não oportunismo do
planner. A opção do meio não existe.

**2. Proibir a ré no plano custa, e assimetricamente.** Varredura inteira em
`DUBIN`: `porta`, `aperto` e `beco` não sentem; `bloco` fica **sem caminho nos
quatro raios** (erro 208, NO_VALID_PATH) e os dois alvos "de lado" passam de
1,50–2,12 para **3,61–5,66** de desvio. Um alvo a 0,60 m custa 2,9–3,4 m de
caminho com ~350° de giro. É o balão de volta, agora nascendo do plano.

**3. Recuar NÃO salva o plano do Dubins.** Essa era a tese natural da ré por
gatilho e eu a testei antes de escrevê-la: recuando reto 0,3 e 0,5 m antes de
planejar, o comprimento **não cai** (2,92 → 2,99 → 3,20 no `perto_de_lado`), e o
`bloco` segue sem caminho. A razão é geométrica e vale para qualquer recuo:
**recuar reto não muda o rumo**. O alvo continua a 90° do bico, e um carro
só-para-frente precisa da mesma volta, saia de onde sair. (A 0,8 m dá
START_OCCUPIED — o robô recua para dentro da inflação da divisória.)

### O que isso revelou, e é o ponto de verdade

**O robô 1 se dá bem com a ré por gatilho porque ele PIVOTA.** Recua, gira no
lugar, o alvo de lado vira alvo de frente. O robô 2 não pivota com os parâmetros
de hoje — zero amostras de giro parado em toda a fase B do perfil pessimista.

Então a escolha depende do pivô, que depende da **zona morta**, sem medida desde
27-07. Decisão 009 escrita e aceita: **plano em Dubins, ré por gatilho no
seguidor**, valendo a experiência de operação; e a dependência fica registrada —
se a zona morta medida mostrar que o pivô não existe, a 008 seção 3 volta à mesa
com número, não com opinião.

Some junto, de graça, o **tremor em cima do alvo** que a varredura achou com
Reeds-Shepp (4 inversões numa caixa de 9 cm). Era a mesma doença, e eu a tinha
arquivado como problema do seguidor.

### Fatia B: o gatilho, e por que ele é tardio

`ProgressoDeAvanco` mede **aproximação, não velocidade** — robô em órbita tem
velocidade e não tem progresso, e é justamente esse o caso. Só acusa depois de
1,5 s CONTÍNUOS sem ganhar 5 cm, e o relógio zera a cada avanço real: dois
travamentos curtos separados não somam.

A decisão 007 havia descartado o sintoma porque ele "gasta N segundos de órbita
toda vez". É verdade, e é o preço certo: o gatilho geométrico age cedo e SEMPRE
que a conta diz que não cabe, inclusive onde se resolveria sozinho — é assim que
nasce o vai-e-volta. Sintoma dispara raro e tarde.

A ré é **cega** enquanto o Mid-360 não estiver no modelo: orçamento curto (0,30 m)
e obrigatório. Com vão medido ele passa a sair de metros reais. E tem teto de
TEMPO além do de metros, que não é redundante: se a pose não muda (comando
engolido pela zona morta), o orçamento em metros nunca é gasto e a ré duraria
para sempre — é o BO-3 visto de outro ângulo.

### Dois testes meus estavam errados, e o segundo ensinou algo

O primeiro usava 3 cm/s como "devagar mas progredindo" e reprovava a lei. Mas
**este robô não anda a 3 cm/s**: abaixo do piso de linear (~0,33 m/s no perfil
pessimista) ele não anda devagar, ele não anda. Ficou um teste novo travando
essa folga — a taxa mínima implícita do gatilho (0,05 m / 1,5 s = 3,3 cm/s) tem
que ficar ~10x abaixo do piso, e se a zona morta medida derrubar o piso, o par
de números volta à mesa.

O segundo simulava o robô chegando e **ficando parado no alvo por 4 s** — e o
gatilho disparava, corretamente. Parado em cima do alvo não é travamento, mas o
detector só vê distância que não cai. Quem sabe que chegou é o seguidor, e é ele
que desarma. Sem isso o robô chegaria, esperaria 1,5 s e daria ré para longe do
ponto onde acabou de chegar. Virou teste.

6 mutações, 6 pegas. **316 testes verdes** (eram 305).

## 🎯 2026-07-29 (8ª leva) — Seguidor, fatia C e o nó: a pilha fecha

### A chegada, e o que a zona morta cobra em PRECISÃO

Duas lições da decisão 006 viraram lei testada:

**O raio de chegada tem um mínimo, e ele é a distância de parada.** O robô não
sabe ir mais devagar que o piso de linear — abaixo disso a placa engole o
comando (BO-3). Então ele entra no raio a `v_piso` e precisa de
`v_piso²/(2·a_lin)` para parar; raio menor que isso e ele atravessa, sai do
outro lado, volta, para sempre. Com os números de hoje (piso 0,335 m/s no perfil
pessimista) isso dá **0,187 m**.

Isso rendeu um argumento que ainda não estava escrito em lugar nenhum: **a zona
morta não encarece só a manobra, encarece a PRECISÃO — e com o quadrado.** Piso
o dobro, chegada quatro vezes mais grosseira. Não há ganho que conserte, e é
mais um peso na balança do item nº 1 da bancada.

**Chegou é chegou: para tudo, inclusive o giro.** Na sessão de 27-07 o robô
chegava e continuava girando para acertar o rumo, arrastando-se para fora do
ponto — 0,06 m viravam 0,27 m. Rumo na chegada não é requisito deste seguidor.

### O nó, e o aviso que ele dá na subida

`robot_motion/path_follower.py` amarra as três fatias: ouve `/plan` e
`/Odometry`, publica `~/rumo_alvo` e `~/velocidade_alvo`, com dois estados
(SEGUINDO / RÉ). A ré sai por **velocidade negativa** no tópico que já existia —
sem tópico novo, como a movimentação já esperava.

Ele grita na subida quando o raio de chegada pedido é impossível, verificado:

```
raio_chegada=0.100 -> ERROR: menor que a distância de parada (0.187 m).
                      O robô vai ORBITAR o ponto sem nunca fechar.
raio_chegada=0.250 -> INFO: aceito (mínimo viável 0.19 m)
```

Vale a pena o grito: o sintoma desse defeito (robô circulando o ponto) parece
problema de controle, e é de configuração.

O único número da movimentação que atravessa para cá é o `v_piso`, e **só** para
essa conta — o nó não conhece zona morta, não conhece `a_dec` de giro e não fala
com roda.

### O CSV que já nasce mirando um defeito que ainda não vimos

O registro grava `rumo_alvo` e `erro_rumo` a cada ciclo de propósito. A leitura
do seguidor do robô 1 mostrou que **o plano salta entre replanejamentos** (13–15°
lá) e que um seguidor que persegue esse salto oscila. Vai nos acontecer, porque o
replanejamento vem do `bt_navigator`. Mas eu não vou pôr filtro agora contra
defeito que não medi neste robô — seria começar a escada de ganhos que a decisão
003 mandou não herdar. O que dá para fazer hoje é garantir que, quando aparecer,
o número esteja na mão.

320 testes verdes (eram 316). 2 mutações na fatia C, 2 pegas.

**Falta para rodar**: a launch juntando Nav2 + seguidor + movimentação no
simulador. Aí dá para ver o robô andando pela primeira vez com esta pilha.

## 🚗 2026-07-29 (9ª leva) — A pilha inteira anda pela primeira vez

`ros2 launch robot_motion pilha.launch.py sim:=true` sobe Gazebo + Nav2 +
seguidor + movimentação, e o robô vai onde você clicar. Primeira vez que esta
pilha dirige.

```
alvo (2,0 · 2,0), 90° atrás    CHEGOU 15,2 s   5,00 m de caminho / 3,00 reta = 1,67x
alvo (6,0 · 1,5), pela porta   CHEGOU 12,3 s   5,55 m / 5,32 reta = 1,04x
```

### Quatro defeitos, e três eram do Nav2 discordando de si mesmo

**1. A árvore padrão derruba o `bt_navigator` na subida.** Ela exige os
servidores `spin`, `backup`, `wait` e `drive_on_heading`. Subir o
`behavior_server` para satisfazê-la seria errado por mérito, não só por
conveniência: `spin` é PIVÔ, que este robô não faz (zero amostras de giro parado
no perfil pessimista), e `backup` é a ré do Nav2, que a decisão 009 tirou do
caminho. E as duas seriam no-op — o `cmd_vel` delas sai pelo tópico ignorado, e a
árvore acharia que recuperou sem nada ter acontecido. Trocado pela árvore de
fábrica `navigate_w_replanning_time.xml`, que replaneja a 1 Hz e não tem
recuperação nenhuma.

**2. E derruba de novo, pela SEGUNDA árvore.** O `bt_navigator` carrega
`navigate_through_poses` junto, com a árvore com recuperação. Não usamos rota com
pontos intermediários: `navigators: ["navigate_to_pose"]`.

**3. O `controller_server` não dirige, mas ABORTA.** Esta foi a premissa errada
mais cara da leva: eu havia escrito que ele era inofensivo porque o `cmd_vel`
dele ia para um tópico ignorado. Na corrida da porta ele derrubou a navegação com
`RegulatedPurePursuitController detected collision ahead!` — o robô tinha
atravessado a porta e parou. O palpite dele é sobre uma trajetória que ninguém
vai executar (ele projeta supondo os comandos DELE), então julgar colisão ali só
pode errar. `use_collision_detection: false`, com o motivo escrito no YAML.

**4. Inflação 0,45 trava o robô DENTRO da porta.** Com raio 0,36 e inflação 0,45,
o vão de 0,90 m fica inteiramente inflado e o replanejamento a 1 Hz falha com
`Start occupied` — a célula do próprio robô conta como ocupada. Medido:

```
inflação 0,45  ->  atravessa a porta e TRAVA
inflação 0,30  ->  chega em 12,3 s, 1,04x a linha reta
```

A produção foi para 0,30 e a bancada fica em 0,45 (é o número por trás dos 48
planos da decisão 008). A divergência é deliberada e está escrita no
`test_configs_coerentes.py`, que trava os números FÍSICOS (raio de curva, raio do
robô) e deixa a inflação de fora de propósito: ela é escolha, não medida.

### Um botão falso que eu mesmo criei, e o que ele ensinou

Para expor a inflação como argumento da launch, passei um override de parâmetro
por um caminho aninhado que eu **não verifiquei**. Ele quebrou a camada de
inflação — o planner passou a gritar "Inflation layer either not found" e a porta
voltou a falhar. Removido, a porta voltou a funcionar na hora.

Lição, e ela é de método: um botão de conveniência não medido custou o mesmo tipo
de tempo que um número herdado não medido. Se não dá para verificar agora, não
entra — melhor editar o YAML do que ter um botão que mente.

### E um artefato de ambiente que mentiu três vezes

`pkill -f <nome>` casa com QUALQUER processo cuja linha de comando contenha o
nome — inclusive o shell que está rodando o próprio `pkill`. Isso matou a sessão
duas vezes e, pior, produziu diagnósticos falsos: uma pilha remanescente
disputando o `/clock` fez uma corrida largar da pose errada com 25 mil
`jump back in time`, e eu quase registrei aquilo como defeito da pilha. A
limpeza agora vive em `mata.py`, que compara por PID.

Regra que fica: **corrida cujo ambiente não foi provado limpo não é medida.**

### O que sobrou anotado, sem conserto

- O alvo a 90° atrás custou **1,67x** a linha reta, e o gatilho de ré disparou
  duas vezes na corrida — uma delas a **0,43 m do objetivo**. Ré perto da chegada
  é suspeito e é a primeira coisa a olhar na próxima sessão. O CSV do seguidor
  (`csv:=`) grava o que falta para diagnosticar.
- A TF `map→odom` é fixa. No simulador vale porque mundo e mapa saem da mesma
  planta; **no robô real não vale**, e é o que falta para a pilha sair do
  simulador.

324 testes verdes.

## 🧰 2026-07-30 — O kit de bancada, e o que o robô do estágio tem a dizer

Sessão sem robô, preparando a ida ao robô. Duas coisas: o banco ganhou um
condutor, e entrou no repo (só para leitura) o workspace do estágio, que roda
**neste mesmo robô** com a pilha Nav2 de fábrica.

### `tools/banco/sessao.py` — o protocolo inteiro num comando

O `ensaio.py` mede UM ensaio; o protocolo tem SEIS, cada um com argumentos,
espaço e pose de partida próprios. Digitar isso na mão com o robô ligado é onde
se erra o `--wz`, se sobrescreve um CSV ou se pula um ensaio — e o custo é voltar
ao laboratório. O condutor roda os seis em ordem, pausa para reposicionar, grava
tudo numa pasta só e chama o `medir.py` depois de cada corrida, para o número
aparecer ainda com o robô ligado.

Três coisas que ele faz e que o `ensaio.py` sozinho não faz:

1. **Conferência que BLOQUEIA.** Sem `/Odometry` toda velocidade do banco sai de
   uma pose que não existe, e o CSV sai limpo e errado — do jeito que só se
   descobre em casa. Ele mede a taxa dos dois tópicos de odometria, conta os
   ouvintes do `cmd_vel` (zero = `diff_drive_controller` fora do ar, e o banco
   comandaria no vazio) e recusa medir se algo faltar.
2. **Cutucão de sanidade** (`--checar --mexer`): anda 2 s, gira 2 s e confere o
   **sinal**. Roda trocada na fiação dá um robô que anda certo e gira ao
   contrário, e **nenhum dos seis ensaios acusa isso** — eles medem magnitude. Ou
   sai aqui, em 5 s, ou a sessão inteira sai espelhada.
3. **Ambiente escrito ao lado** (`ambiente.txt`: piso, bateria, commit). Piso e
   carga mudam derrapada e zona morta; medida sem eles não se compara com a
   próxima sessão nem entra no artigo.

Provado de ponta a ponta contra o Gazebo headless antes de existir como
recomendação — os seis passos, as onze corridas, leitura saindo em cada uma. A
conferência também foi provada no **caso negativo**, com a pilha derrubada:
recusa e explica. Folha de campo em `tools/banco/CHECKLIST_ROBO.md`.

### O workspace do estágio: mesma máquina, três números que divergem

Clonado em `ESTAGIO-2026/` (ignorado pelo git — é repo próprio, e o que sai daqui
vira medida nossa, não código copiado). Ele **anda** e faz SLAM, o que o nosso
ainda não faz no robô; e se perde, e faz recuperação quase só de ré. Lendo os
YAMLs contra a nossa trena de 29-07, três hipóteses caem no colo da bancada:

**1. Dois raios de roda contraditórios na mesma pilha.** O
`diff_drive_controller` usa `wheel_radius: 0.0425`; o plugin de hardware, no
xacro, `0.0825`. A conversão do driver é `rad/s ÷ 0,10472` — **independente de
raio** —, então quem fixa a escala é o controlador. Nossa trena mediu 0,080.
Efeito: a roda gira `0,080/0,0425 ≈ 1,9×` mais rápido do que os m/s pedidos. Um
robô que anda ao dobro do que o Nav2 acha que mandou se perde por construção, e
nenhum ajuste de controlador conserta isso.

**2. `wheel_separation: 0.32` contra os 0,270 medidos.** Bitola 18,5% maior no
YAML faz o robô girar ~19% a mais do que o comandado — que é exatamente o desvio
que anotamos em 29-07 quando esse mesmo 0,32 era nosso.

**3. O piso de velocidade do mux protege a reta e não protege o giro.** O
`cmd_vel_mux.py` deles força mínimo de 0,10 m/s no linear e 0,15 rad/s no
angular. Com bitola 0,32, esses 0,15 rad/s são **0,024 m/s de roda** — quatro
vezes abaixo da faixa de zona morta que nosso simulador trata como plausível
(0,10–0,15 m/s). O piso angular não pisa em nada. E o `Spin` do Nav2 decai até
`min_rotational_vel` (0,4 rad/s de fábrica = 0,064 m/s de roda, também abaixo),
enquanto o `BackUp` é linear puro e o piso de 0,10 m/s o levanta sempre.

Daí a hipótese, que é a mais útil das três: **"só vai de ré" pode não ser a
boba — pode ser que a ré seja a única recuperação que fisicamente acontece.**
O `spin` estola no meio, a árvore o dá por falho e escala para o `backup`, que
sempre anda. É a nossa BO-3 vista de fora, num robô que já roda.

Nenhuma das três é fato nosso: são hipóteses, e as três se resolvem com o
**ensaio 2** (zona morta de giro) e o **ensaio 4** (curva por velocidade). O item
nº 1 da bancada acabou de ganhar uma quarta razão de peso.

Anotado sem investigar: os tetos deles são `linear.x.max_velocity: 3.0` e
`max_acceleration: 3.0` (contra 0,7 e 0,8 nossos), o `controller_manager` roda a
10 Hz, e o footprint declarado é 0,50 × 0,40 — mais estreito que a caixa que
medimos com trena (0,433 × 0,455).

## 🔌 2026-07-30 (2ª leva) — A ida ao robô: o repo nunca tinha chegado aqui

Sessão de bancada para medir a **zona morta de giro** (ensaio 2, item nº 1). O
dono só executa o físico; o assistente conduz por ssh no NUC. Antes de qualquer
medida, dois achados de infra que valem registro — o segundo é grande.

### A rede primeiro: o PC de dev não enxergava o NUC

`10.244.3.205` (NUC) contra `10.150.13.54/19` (PC de dev): **sub-redes
diferentes**, o gateway não encaminhava, ping e ssh davam timeout. Não era senha
nem robô desligado — era topologia. Resolvido pelo dono ao pôr o PC de dev na
**mesma rede do robô** (`wlp3s0`); daí o ssh entrou por chave, sem senha. Fica a
lição de bancada: a primeira conferência não é do lidar, é de haver rota até o
NUC.

### O achado grande: este NUC nunca tinha visto o nosso repo

`~` no NUC tinha `ros2_ws` (o do estágio: `FAST_LIO`, `livox_ros_driver2`,
**`hoverboard-driver-humble`**, `robo_exemplos`, mapas de SLAM) e
`Workspace/competicao_2025` — e **nenhum `Controle_robo_livox`**, nenhum
`base.launch.py`, nenhum `tools/banco/`. Uptime de 7 min, `install_ros2_jazzy.sh`
e `ros2_ws.zip` soltos no home: a máquina foi (re)instalada e o nosso software
nunca foi puxado para ela. O `ESTADO` dizia "base verificada em hardware" — foi,
num estado da máquina que não existe mais. **A memória do assistente não cruza
PCs, e o disco do robô também não guardou.** É a razão de o `ESTADO_PROJETO.md`
existir, provada pela ausência.

Confirmado que é o robô certo mesmo assim: `enp2s0` em `192.168.1.2/24` — a
interface do lidar que o `ESTADO` descreve.

### O deploy, sem GitHub e sem sudo

O NUC não clona do GitHub: origin é ssh (`git@github…`) e ele não tem chave; por
HTTPS o repo é privado e não há credencial. Como o repo local do dev estava
**em sync com `origin/main`** (`2aa17bd`, limpo), semeei por **`git bundle`** —
git-nativo, histórico completo (6,5 MB, `verify` ok), não é "arquivo solto" da
regra 8. Clonado em `~/Controle_robo_livox`, `origin` reapontado para o GitHub.

Terreno conferido antes de compilar, tudo sem `sudo`: `ros2_control` já
instalado (controller-manager, diff-drive-controller, hardware-interface,
ros2-controllers), `bara` no grupo `dialout`, placa em
`/dev/ttyUSB0` (Prolific USB-Serial), **SDK nativo da Livox já em `/usr/local`**
(do estágio) — o único passo com sudo do `setup_livox.sh` se pula sozinho.
Config do lidar commitada: host `192.168.1.2`, lidar `192.168.1.169` (a conferir
contra a varredura na hora do `--checar`).

### O tropeço de ordem de build (não é bug, é dependência)

`setup_livox.sh` compila só `livox_ros_driver2 + fast_lio + robot_base` — **não**
o `hoverboard_driver`. Mas `robot_base` depende dele, e num workspace zerado
`install/hoverboard_driver` não existe → `robot_base` falha na configuração
(0,02 s, antes de compilar linha nenhuma). Nas máquinas anteriores o
`hoverboard_driver` já fora compilado numa passada avulsa; aqui, primeira vez, não.
Conserto pela ordem: compilar `hoverboard_driver` primeiro, depois re-rodar o
`setup_livox.sh` (idempotente — clones já presentes, só refaz o build).

### O build subiu, com dois consertos de infra (não de calibração)

1. **Ordem de build:** `hoverboard_driver` compilado ANTES do `setup_livox.sh`
   (que só faz livox+fast_lio+robot_base). Sem isso `robot_base` falha na
   configuração por falta de `install/hoverboard_driver`. Depois: `fast_lio`
   (59 s), `livox_ros_driver2` e `robot_base` compilaram limpos.
2. **`launch_ros >=0.26` recusa `robot_description` cru** (lê como YAML; um URDF
   não é YAML). A máquina anterior tinha `launch_ros` mais tolerante; este NUC
   recém-instalado (pacotes de 2025-10-07) não. Conserto em `tracao.launch.py`:
   `ParameterValue(robot_description_content, value_type=str)` — forma correta no
   novo e no antigo. Aprovado pelo dono, aplicado em dev e NUC (md5 idênticos),
   COMMITADO. Sem ele a base não sobe.

### O lidar não streamava — e a lição do `kill -9`

Base de pé, mas `sessao.py --checar` **reprovou**: `/Odometry` não publicava.
`/hoverboard_base_controller/odom` a 9,9 Hz e `cmd_vel` com ouvinte — a placa
falava, faltava a localização. Varredura ARP: lidar em `192.168.1.169`
(`e4:7a:2c:90:1d:f1`), **exatamente o IP do config**. Não era IP.

Cavando: `/livox/lidar` e `/livox/imu` **mudos**, mesmo com QoS best_effort. RX na
`enp2s0` (contado no fio, antes de firewall): **6 pacotes/3 s** — o lidar respondia
ping e ACKava todo comando de controle (work mode Normal, IMU enable), mas **não
transmitia dado**. Rodei o driver do **estágio** (o que funciona) para isolar:
mesmo handshake, **mesmos 6 pacotes/3 s**. Concluí "é o lidar" — e o dono, com
razão de campo ("rodou ONTEM"), religou o Mid-360. Depois do power-cycle: RX
**9152 pacotes/4 s (~3 MB/s)**, o log ganhou as linhas `livox/lidar publish use
livox custom format`, e `--checar` passou: `/Odometry` a 9,9 Hz. **Conferência ok.**

Lição registrada: subi e matei o driver livox com `kill -9` várias vezes no meio
do handshake, depurando o launch. O Mid-360 **tranca a sessão de dado** quando o
driver morre no meio — provável que eu mesmo tenha travado o lidar. Da próxima:
derrubar o driver com SIGINT e esperar, nunca `-9` no meio da subida.

### O cutucão pegou o defeito que os seis ensaios NÃO pegariam

`sessao.py --checar --mexer`, com o dono avisado do lado e da velocidade:

```
[ok]    +0,25 m/s andou +0,737 m PARA FRENTE (lado: -0,204 m)
[FALHA] +0,6 rad/s girou -78,5° — sentido INVERTIDO
```

- **Frente: sentido certo.** (A deriva de -0,20 m para a direita o dono
  reconheceu como **distribuição de peso** — acontece também quando ele chuta o
  robô. Não é fiação; é viés mecânico de rumo, dado de projeto do controlador.)
- **Giro: espelhado.** Comando anti-horário (+), robô girou horário (-). É
  **esquerda/direita trocadas** (fiação da placa ou YAML): com as rodas
  invertidas, a reta sai certa (as duas no mesmo sentido) e só o giro espelha. É
  exatamente o que o cutucão existe para pegar, e o que **nenhum dos seis ensaios
  acusaria** (medem magnitude). Sem o cutucão, um dia de medida sairia lixo.

**PARADO aqui pela regra 3.** A zona morta — item nº 1 — **não foi medida**: medir
com o giro espelhado é medir errado.

Números crus do cutucão, a confirmar nos ensaios (não são medida formal): a reta
andou ~0,37 m/s para 0,25 comandado e o giro ~0,68 rad/s para 0,6 — os dois saíram
ACIMA do comandado, ao contrário do déficit de -20% que o Gazebo (com a boba do
BO-4) sugeria. Se confirmar, o simulador erra o sinal do desvio de giro também.

### Onde parou / primeira coisa amanhã

1. **Inverter esquerda↔direita e RE-TESTAR o cutucão.** Fix mínimo e reversível em
   `ros2_packages/hoverboard_driver/bringup/config/hoverboard_controllers.yaml`:
   trocar `left_wheel_names: ["left_wheel_joint"]` /
   `right_wheel_names: ["right_wheel_joint"]` por
   `left_wheel_names: ["right_wheel_joint"]` /
   `right_wheel_names: ["left_wheel_joint"]`. Rebuild do `hoverboard_driver`,
   `--checar --mexer` de novo: o giro tem de sair **+** (esquerda). O dono já
   mandou inverter; **não apliquei hoje** porque a validação exige o robô andando
   com alguém de olho, e ele saía. NÃO commitar o swap antes do cutucão validar.
2. Passando o cutucão, rodar a sessão: **zona morta de giro (ensaio 2)** é o alvo,
   e o passo 6 (ré + boba filmada) ataca o BO-4.

**Dívida de infra (fora desta sessão):** o NUC não tem autenticação no GitHub —
nem `fetch` nem `push`. Este deploy veio de bundle; o `git fetch && git reset
--hard origin/main` do passo 1 do checklist não roda ainda, e o passo 6 ("commit
docs/dados && push" do robô) também não. Enquanto isso: código vai por bundle do
dev, e os CSV/commits saem **do dev** (que tem chave), com os dados trazidos do
NUC. Corrigir com uma chave de deploy no NUC registrada no GitHub.
## 📊 2026-07-31 — O protocolo não repetia nada, e a rampa media metade do problema

Sessão de véspera: o dono vai ao robô hoje. Começou como conferência do kit de
bancada e virou uma revisão de método, provocada por duas perguntas dele que o
protocolo não sobrevivia.

### "Eles se repetem?" — não, e nenhum número tinha faixa

O protocolo tinha 6 ensaios e 11 corridas, e **as 11 eram condições
diferentes**: os "3" dos passos 3, 4 e 6 são três *valores* (wz 0,3/0,6/1,0),
não três tentativas. Todo número sairia com n=1, sem dispersão. Num PIBIT que
vira artigo isso não se defende — número sem espalhamento não é medida, é
amostra.

Repetir tudo ×3 dariam 33 corridas e ~50 min de bateria. O dono decidiu a
prioridade: repete o que identifica erro (reta, curva, aceleração). Ficaram
**27 corridas, ~30 min**, com `--repete 1` para encurtar se a bateria cair.

Cada grupo de repetições agora imprime **média, faixa e dispersão** ao fechar
(`medir.py --resumo`), e delata sozinho quando uma corrida morreu e a repetição
encolheu — no Gazebo isso aconteceu duas vezes (relógio do simulador sob carga)
e o aviso apareceu certo, sem eu procurar.

**Uma corrida a mais que não é repetição: a reta girada 180°.** Três retas do
mesmo ponto e mesmo rumo, com o piso em caimento, dão três desvios iguais e uma
média confiante e errada. **Média mata erro aleatório, não erro sistemático.**
Girado 180°, o caimento empurra para o mesmo lado do *mundo* e a assimetria do
robô puxa para o mesmo lado do *corpo* — é a única corrida que separa robô de
sala. O ponto 0 passa a ser marcado com fita **e com o rumo**, senão a dispersão
medida é a mão do operador.

### "A zona morta é subir a velocidade até ele sair do lugar?" — era, e era pouco

Era exatamente isso: `rampa_ate · te / dur`, uma subida só. Duas limitações que
a pergunta expôs:

1. **uma corrida, uma amostra.** Limiar de atrito estático é a grandeza mais
   dispersa do banco (depende de onde o rotor parou), e a decisão do pivô se
   joga entre 0,10 e 0,15 com **4% de folga**. Uma amostra não diz onde na
   faixa se está.
2. **mede a saída e não mede a queda.** Atrito estático > dinâmico: o comando
   que *tira* o robô do lugar é maior que o que o *mantém* andando. O primeiro é
   o número do BO-3; o segundo é o que o piso de velocidade do seguidor precisa.
   Só o primeiro existia.

O ensaio virou **dente de serra**: sobe até sair do lugar, desce até parar,
inverte o sentido, repete 4×. Uma corrida entrega 4 saídas + 4 quedas, nos dois
sentidos, sem reposicionar o robô. A repetição passou para DENTRO da corrida, e
por isso os passos 1 e 2 não repetem em corrida.

**A primeira versão não cabia na sala, e foi o teste que disse.** Com o dente
virando por tempo, o afastamento máximo da origem no ensaio linear dá **5,25 m**
contra uma trava de 3 m que **mata a corrida** ("Estourou, para tudo"): morreria
dentro do primeiro dente e traria uma saída só — pior que a versão antiga. Causa:
a rampa segue subindo muito depois de já ter achado o número, e é esse trecho
que gasta metros e segundos.

Conserto: **o dente vira no evento, não no relógio.** Medido depois: excursão de
**0,059 m** e 4 dentes em 18 s (contra 160 s da versão por tempo). É o único
ensaio do banco em malha fechada, e é de propósito.

**A taxa da rampa virou parâmetro nomeado** (`--rampa-seg`, padrão 20 s ao
teto), porque ela *é* parte da medida: o limiar é lido na primeira amostra que
passa de `LIMIAR_PARADO`, então rampa mais rápida infla o número pelo atraso de
detecção. No giro a taxa de hoje já infla ~0,011 rad/s — 10% do que se quer
distinguir. Mais dentes custam tempo, nunca precisão.

### Um defeito achado no Gazebo, e o `tools/banco` ganhou testes

A leitura acusava `1 dente(s) NÃO saíram do lugar` com os 4 tendo saído: ao fim
da pausa o contador andava e uma linha chegava a ser gravada com um dente que
nunca existiu. Consertado dos dois lados — encerrando antes de gravar, e na
leitura, ignorando rampa cortada no meio (que é o caso real quando o teto de
tempo corta a última).

O `tools/banco/` **não tinha teste nenhum**, que é exatamente como a régua da
bancada do planner sobreviveu errada por semanas em 29-07. Agora tem 17, e o do
dente fantasma foi verificado por mutação: reintroduzi o defeito e ele falhou.
Suíte: **397 verdes** (eram 380).

### O que este dia NÃO prova

No simulador o `ensaio.py` publica direto no `cmd_vel` do controlador e **passa
por fora da placa fingida** (ela escuta `/cmd_vel_bruto`). Os 0,023 m/s e
0,036 rad/s que saíram nos testes são o **piso de detecção**, não zona morta: o
Gazebo provou o *mecanismo* do dente de serra, não o número. No robô a placa
está no caminho, e é lá que o número existe.

### A conferência passa a ler a calibração VIVA (a dívida da manhã, fechada)

O `--checar` agora pergunta ao `hoverboard_base_controller` **que robô ele acha
que está dirigindo**: `wheel_separation`, `wheel_radius` e os nomes de roda,
lidos do nó vivo por `AsyncParameterClient` e comparados com a trena.

Fechou o buraco que eu tinha anotado de manhã: o `ambiente.txt` gravava o
**commit**, e commit descreve o FONTE. Quem dirige o robô é a cópia em
`install/`, e o `tracao.launch.py` lê os dois de `FindPackageShare`. Agora a
calibração viva vai escrita no `ambiente.txt`, com marcador `*** DIVERGE DA
TRENA ***` quando for o caso — sem isso, um limiar medido não tem como ser
convertido de volta em velocidade de roda, e vira número sem unidade.

**Delata, não bloqueia.** Divergir pode ser deliberado; o que não pode é ninguém
saber. Verificado nos dois sentidos contra o Gazebo, com a calibração
adulterada em tempo de execução: com 0,32 ele acusa `+18.5%` e a sessão segue,
com o número gravado ao lado do dado.

Os nomes de roda entraram junto porque é neles que vive a correção do giro
espelhado: a conferência agora diz `swap APLICADO` ou `NÃO aplicado` **antes**
de o robô se mexer, o que prova que o rebuild pegou sem gastar bateria. Os dois
estados verificados ao vivo.

A folha de campo virou executável de ponta a ponta — um bloco "para quem for
conduzir" com a ordem e cinco coisas que não se faz, e o swap de rodas como
script copiável (testado e revertido; **não commitado**, conforme a decisão de
30-07 de só entrar no git depois de o cutucão validar). 22 testes no banco,
**402 verdes** no total.

### O giro passa a ser o ensaio 1, a pedido do dono

Pergunta dele: *"se não sabemos a zona morta ainda, por que esse não vira o
teste 1?"* — e o giro estava em segundo, atrás do linear. Invertido, por três
razões em ordem de peso:

1. **o ensaio de giro responde a pergunta do pivô DIRETAMENTE.** O menor `wz`
   que gira o robô parado *é* o limiar do pivô, em rad/s. Pelo linear só se
   chega lá convertendo por `2·zm/L` — confiando de novo na bitola, que é
   justamente o tipo de dependência que a trena de 29-07 ensinou a desconfiar;
2. **sessão cortada perde o que está por último**, e em 30-07 a sessão foi
   bloqueada sem medir nada. O risco não é hipotético;
3. é o mais barato de montar — gira parado, raio de 1 m, sem corredor.

O argumento contrário ("andar reto é mais manso do que girar como primeira
coisa") já estava coberto pelo cutucão, que anda **e** gira antes de qualquer
ensaio. O linear ganhou um papel novo e melhor: **conferência do passo 1**, já
que os dois medem o mesmo atrito por caminhos diferentes e têm de fechar por
`2·zm/L`. Não fecharam, ou a bitola está errada ou as duas rodas não são iguais.

Travado em teste (`test_o_giro_e_o_primeiro_ensaio_da_sessao`), junto com dois
que impedem a numeração dos passos e os prefixos dos CSV de descolarem.

### O dente #0 destoa, e é física, não ruído

A corrida de validação no Gazebo entregou dispersão de **82%** no passo 1: dente
#0 em 0,188 rad/s contra 0,035 dos outros três. No simulador é o robô assentando
na física, mas o efeito tem nome e é real no robô: **atrito estático cresce com o
tempo parado**. O dente #0 parte de repouso longo; os demais, da pausa de 1 s
entre dentes. São condições físicas diferentes, e a média das quatro as mistura
bem no número do BO-3 — que é exatamente "o robô estava parado e mandaram andar".

O `medir.py` passou a **separar em vez de diluir**: quando o #0 destoa mais de
30% da mediana dos outros, ele mostra os dois e diz qual serve para cada caso
(arrancar do repouso × arrancar em manobra encadeada). Não corrige a média —
qual dos dois usar depende de quanto tempo o robô fica parado na operação real,
e isso é decisão de projeto, não de leitura.

### Corrigido depois: a sessão 07-30 no robô já tinha respondido isto

Ao juntar com o remoto apareceu a entrada 07-30 (2ª leva) — uma ida ao robô que
eu não conhecia. Ela reescreve duas coisas desta sessão:

- **O `install/` velho não era o caso, e o build importa mais ainda.** O NUC
  nunca tinha visto este repo; foi deployado do zero por bundle e compilado
  inteiro. Só que o giro saiu **espelhado** (esq/dir trocadas: `+0,6 rad/s`
  girou `−78,5°`), e o conserto é justamente no `hoverboard_controllers.yaml`,
  que o `tracao.launch.py` lê do `install/`. **Sem rebuild o swap não existe
  para o robô** — o mecanismo que descrevi, valendo por outro motivo.
- **O `git fetch && git reset --hard` do passo 1 não roda no NUC**: ele não tem
  autenticação no GitHub. Folha de campo corrigida para o caminho de bundle.

E o mais importante para hoje: **a zona morta não foi medida em 07-30**, parada
pelo giro espelhado. O dente de serra que escrevi hoje vai estrear numa máquina
que primeiro precisa passar no cutucão. A ordem virou: swap → rebuild →
`--checar --mexer` → só então medir.

Vale registrar que o cutucão fez exatamente o que se desenhou: pegou, em 5
segundos, um defeito que **nenhum dos seis ensaios acusaria** (eles medem
magnitude), e que teria transformado um dia inteiro de medida em lixo.

### Anotado sem conserto: build e install/ podem divergir

Levantei que a bitola e o raio medidos com trena moram em arquivos que o
`tracao.launch.py` lê de `FindPackageShare` — da cópia **instalada** —, e que a
folha de campo mandava `git reset --hard` direto para o `source`, sem build. Se
o `install/` estiver velho, o robô sobe com 0,32/0,0825 e todos os limiares saem
18,5% enviesados sem sintoma.

**Cheguei a afirmar que o robô estava assim; não tinha como saber e o dono me
corrigiu** — nunca vi o disco daquela máquina. O que se sustenta é o
condicional. A folha de campo ganhou o `colcon build --packages-select
hoverboard_driver` (idempotente, barato) e um `grep` de conferência. A defesa
melhor — o `--checar` LER `wheel_separation` e `wheel_radius` do controlador
vivo e anotá-los no `ambiente.txt` — ficou **por fazer**: o `ambiente.txt` grava
o commit, que descreve o fonte, não o que está dirigindo o robô.

Isso importa porque a comparação roda × lidar (ideia do dono, e o banco já a
tinha na coluna de derrapada) mede o giro limpo, mas **não separa bitola errada
de escorregamento**: os dois mexem no mesmo número em sentidos opostos (0,32 num
robô de 0,270 faz girar 18,5% *a mais*; derrapar faz girar *menos*), e
`1,185 × 0,82 ≈ 0,97` leria como "quase não derrapa". Na reta a comparação é
limpa — sem derrapagem, o desvio roda × lidar é raio de roda puro.

## 🧭 2026-07-31 (2ª leva) — Trocar de repositório? A pergunta se dissolve na apuração

Pergunta do dono, com o robô prestes a entregar os primeiros números:

> vale continuar neste repositório ou pegar o `Controle_robo_web`, que já está
> pronto, e só adaptar a navegação? Aquele já foi todo o sofrimento que talvez a
> gente sofra tudo aqui de novo.

Fui apurar antes de opinar, e o dado mudou a pergunta: **este repositório já É o
`Controle_robo_web`.** Clone com histórico completo (decisão 000), 537 commits, e
o que se chamaria de "reaproveitar o resto" está no working tree hoje —
`nav2_params_legacy.yaml` (368 linhas), `unstuck_supervisor.py` (1433),
`motion_guard.py` (683), a árvore de comportamento, o `path_follower` dele. A
demolição de 14-07 tirou só o que era do robô 1 *como missão*. Migrar de volta
seria refazer a demolição e reimportar MEGA, LD06 e knobs de skid-steer.

**Mas o medo dele está certo, e o desperdício está acontecendo aqui dentro.**
Evidência: em 29-07 brigamos com a inflação do Nav2, medimos, e chegamos em
`inflation_radius: 0.30`. O arquivo do robô 1, dois diretórios ao lado, diz
`0.25`, testado em campo. Rederivamos por experimento o que estava escrito. Trocar
de repositório não conserta isso — o arquivo estaria igualmente por ler.

Registrado na **decisão 010**: ficar, e reaproveitar a camada de segurança do
robô 1 adaptando-a ao Mid-360 em vez de reescrevê-la. Herdar estrutura e
raciocínio; **re-derivar os números**, porque todos nasceram de um chassi de 4
rodas — o `collision_monitor` de lá justifica o `angular_limit` com uma zona
morta de **1,7**, que o `CLAUDE.md` proíbe herdar explicitamente.

### O dono cortou uma simplificação minha, e tinha razão

Eu havia tratado a camada de segurança como bloco. Ele: *"unstuck, motion guard,
collision monitor são ótimos, não precisam morrer, só serem adaptados para um
sensor MELHOR"*. Fui ver o acoplamento de cada um, e são três casos distintos:

- **`collision_monitor`** — nó do Nav2, aceita `pointcloud` nativamente. É
  **config** mais a geometria deste chassi (os polígonos de lá são ±0,25 de
  meia-largura contra os 0,433 × 0,455 medidos aqui). O mais barato e o que mais
  ganha com 3D: o anel planar não via obstáculo acima nem abaixo do plano.
- **`motion_guard`** — assina `scan_safe` **e** `map`, e a parte do
  `OccupancyGrid` está lá para caçar "fantasma de vidro" do LD06. Com sensor
  melhor isso não é adaptado, é **deletado**. Boa notícia, mas sobrevive menos
  código do que parece.
- **`unstuck_supervisor`** — a ideia é agnóstica e é das melhores do robô 1
  (recuperar por *não progrediu*, medindo espaço livre antes de dar ré); tanto que
  a decisão 009 já é isso reescrito. As 1433 linhas é que são moldadas em
  varredura planar: vão traseiro por ângulo, corredor retangular, varredura
  girada por −θ.

### O risco que ninguém tinha nomeado ainda

**Nuvem 3D não é drop-in de varredura 2D, e num aspecto é pior.** O Mid-360 tem
padrão de varredura não repetitivo: num quadro de 100 ms a cobertura é esparsa e
desigual, não um anel uniforme de bins angulares. Código que pergunta "qual o
alcance mínimo neste setor angular" recebe resposta instável. Melhor em
informação, mais difícil nesse padrão de acesso.

Saídas a decidir com dado: acumular quadros, ou projetar um **anel sintético** só
para a camada de segurança. Isso reabre, em escopo restrito, o `/scan` derivado
que a 003 descartou — e vale dizer em voz alta que são coisas diferentes: derivar
2D para **não bater** não é derivar 2D para **se localizar**.

### O levantamento fica agendado, não feito

Tudo acima saiu de `grep`, tamanhos e cabeçalhos — **não** de leitura a fundo.
Está anotado como próximo passo 5 do `ESTADO_PROJETO.md`, com gatilho explícito:
roda **quando os dados da bancada chegarem**, porque os polígonos e os limites de
velocidade a re-derivar dependem da zona morta e do `a_dec` medidos. Fazer antes
seria produzir número para trocar depois.

## 🎯 2026-07-31 (3ª leva) — Os dois primeiros números do robô, e o LIO caindo

Sessão de bancada com o robô ligado. **Saíram as duas zonas mortas medidas** —
os primeiros números do robô 2 que não são herança nem chute. E o caminho até
elas derrubou três coisas que a gente achava que sabia.

### O giro espelhado não existia: quem mentia era o sensor

O bloqueio aberto desde 30-07 dizia "esquerda/direita trocadas". O commit
`368ea13` trocou `left`/`right` no `hoverboard_controllers.yaml` e o cutucão
"confirmou" (+59,3° pós-swap contra −78,5° antes).

Confirmação visual com o dono atrás do robô, base **sem** swap: comando de giro
à esquerda → **o nariz foi para a esquerda**, fisicamente correto, enquanto o
LIO reportava −68,2° com rótulo "direita". O yaw do LIO vem com **sinal
invertido**. O alerta de "giro invertido" do cutucão é falso alarme por
construção: ele compara o comando com esse yaw.

Ou seja, o swap consertava um sintoma inexistente e quebrava um robô que já
estava certo — com o swap, os +59,3° do LIO correspondiam a um giro físico para
a direita. Revertido em `595cf80`.

**Lição de método, e é a mesma da bitola:** o cutucão validou o swap porque
media com o instrumento defeituoso. Validação por instrumento suspeito confirma
o que você quiser. O que desempatou foi o olho do dono.

### O LIO não erra só o sinal: ele fabrica movimento

O primeiro ensaio de zona morta de giro rodou com o gatilho no `/Odometry`, e o
CSV guarda as duas odometrias no mesmo instante:

| | LIO (`/Odometry`) | roda (encoder) |
|---|---|---|
| excursão de yaw | **+143,8°** | +8,7° |
| `wz` máximo | **2,9 rad/s** | 0,139 rad/s |
| deriva xy num pivô | 0,23 m | — |

O comando nunca passou de 0,106 rad/s, e o LIO marcou 0,75 rad/s **durante a
pausa, com comando exatamente zero**. Depois, medido direto: com o robô parado,
o ruído de `wz_pose` chega a **0,0326 rad/s** — e o gatilho do dente de serra
dispara em `SAIU = 0,03`. **O ruído do LIO parado é maior que o limiar de
disparo.** O ensaio não tinha como não disparar no ruído.

Daí `ensaio.py --fonte {lio,roda}` e `medir.py --fonte`: escolhe quem **vira o
dente**, com as duas fontes sempre no CSV. O padrão continua `lio` — encoder
mede o EIXO, não o robô, e não enxerga derrapagem; é medida pior, que só se usa
enquanto o LIO estiver quebrado.

### O erro que quase virou número publicado

Com o gatilho na roda, o ensaio de giro devolveu **0,032 rad/s**, dentes
apertados (desvio 0,003), quantização 15× abaixo do limiar, giro líquido
coerente e alternando. Tudo dizia "medida boa".

**O dono, olhando: "no giro ele não se mexeu."**

E estava certo. `SAIU = 0,03` significa coisas diferentes nos dois ensaios: na
reta são 0,03 m/s de borda de roda; no giro eram 0,03 rad/s = **0,0040 m/s** de
borda. O ensaio de giro estava ~7× mais sensível e mediu **rastejo de eixo** —
os "2° por dente" eram folga mecânica, não pivô. Reanálise dos dois CSVs num
critério físico comum confirmou: no giro a borda da roda **nunca cruzou nem
0,006 m/s**.

Corrigido: o gatilho do giro passa a comparar `wz·L/2`, e `medir.py` recebe a
mesma conversão via `--bitola` — quem vira o dente e quem lê o CSV têm de
concordar sobre o que é "imóvel". Travado em teste
(`test_rastejo_de_eixo_no_giro_nao_vira_zona_morta`).

Se o dono não estivesse olhando, 0,032 rad/s ia pro YAML com quatro dentes
concordando e uma tabela bonita atrás. **Dispersão baixa não é validade** — os
quatro dentes concordavam porque mediam a mesma folga.

### Os números

Refeito o giro com o critério certo: 43° a 47° líquidos por dente, sentido
alternando, **confirmado a olho pelo dono**.

```
zona_morta_linear = 0,021 m/s    (queda 0,014)   dentes 0,018 0,023 0,021 0,022
zona_morta_giro   = 0,131 rad/s  (queda 0,106)   dentes 0,116 0,142 0,117 0,148
```

Em velocidade de borda de roda, que é o que a roda sente:

| | comando | borda de roda | faixa |
|---|---|---|---|
| reta | 0,021 m/s | **0,021 m/s** | 0,018–0,023 |
| giro | 0,131 rad/s | **0,0177 m/s** | 0,0157–0,0200 |

**As faixas se sobrepõem: a zona morta é propriedade da RODA, não da manobra.**
Girar parado não é o pior caso — o `tools/banco/README.md` afirmava que era, e a
frase foi corrigida junto com esta entrada. Era herança do skid-steer de 4 rodas
do robô 1, exatamente o que o `CLAUDE.md` manda não herdar. Aqui a herança
sobreviveu disfarçada de comentário técnico, e só caiu porque foi medida.

CSVs: `2026-07-31-zona-morta-giro.csv` (o inválido, do LIO — guardado de
propósito: o contraste está no arquivo), `-giro-roda.csv` (o do rastejo),
`-giro-borda.csv` e `-linear-roda.csv` (os válidos).

### O que esta sessão NÃO entrega, e por quê

`curva`, `reta` e `degrau_giro` **não** rodaram. Não é escolha de ritmo: os três
medem coisa que odometria de roda não pode ver. `curva` mede derrapagem, que é
por definição roda girando sem o robô ir junto; `reta` é laudo sobre o rumo do
corpo assentar; `degrau_giro` mede a desaceleração depois de cortar o comando,
justo quando a roda desliza livre. Rodá-los pela roda produziria número com cara
de resultado.

Todos dependem de pose confiável, e o LIO tem sinal de yaw invertido **e** ruído
de 0,033 rad/s parado. **Esse é o próximo bloqueio, e agora ele é o caminho
crítico do banco inteiro.** Suspeita a investigar (não confirmada): extrínseco
ou orientação da IMU do Mid-360 mal configurados explicariam sinal trocado e
divergência em movimento pequeno de uma vez só.

## ⚠️ 2026-07-31 (4ª leva) — Retratação: os números da 3ª leva são inválidos

Esta entrada **desmente a anterior**. Fica registrada em vez de editada porque o
erro é o resultado mais útil do dia.

### O que estava errado

**`open_loop: True` no `hoverboard_base_controller`.** Confirmado por
`ros2 param get`. Com ele, `/hoverboard_base_controller/odom` **não mede nada**:
integra o comando publicado e devolve. Não é odometria de roda, é o comando
ecoado.

Foi nisso que a 3ª leva construiu o `--fonte roda`. Consequências:

- **As duas zonas mortas da 3ª leva são artefato.** O limiar de detecção linear
  é `LIMIAR_PARADO = 0,020 m/s` e a "medida" deu **0,021 m/s**: era o próprio
  limiar, ecoado. No giro, limiar equivalente 0,148 rad/s, "medida" 0,131.
- **A "quantização de encoder de 0,0004 rad"** que serviu de prova de qualidade
  era o `round(..., 4)` do próprio `ensaio.py` ao escrever o CSV.
- **A condenação do LIO caiu junto.** "O LIO fabricou 143,8° num pivô de 8,7°"
  comparava o LIO com o comando ecoado. Referência falsa.

### O LIO estava bom o tempo todo

Medido, robô parado, 20 s, sem comando: `/Odometry` a 10,0 Hz, deriva de yaw
**+0,05°**, excursão **0,54°**; deriva xy 0,009 m. O gyro tem viés de
−0,0223 rad/s e o FAST-LIO o remove (seriam 25° em 20 s).

O "ruído de 0,033 rad/s" que motivou o `--fonte` era **derivada**, não sensor:
`JANELA_S = 0,2 s` sobre pose a 10 Hz pega DUAS amostras, e 0,54° em 0,2 s dão
0,047 rad/s. O comentário do próprio arquivo avisa que janela curta amplifica
ruído. Agora é `--janela` (use 0,5 no robô).

O dono disse desde o começo para confiar no LIO. Estava certo, e a insistência
custou a sessão.

### Três vezes o LIO bateu com o olho do dono

- `giro-roda.csv`: dono disse "no giro ele não se mexeu"; LIO mediu 0,03° a
  0,21° por dente. **Não moveu.**
- `linear-roda.csv`: dono viu 4 movimentos; LIO mediu 0,66 a 0,78 m por dente.
  (O comando ecoado dizia 5 cm.)
- rajada de `wz=0,3` por 1,5 s: dono disse "quase 180, uns 190"; LIO mediu
  109,3° sob comando + 85,4° de inércia = **194,7°**.

### Os números, refeitos pelo LIO por DESLOCAMENTO de pose

Critério: deslocamento acumulado desde o início do dente, limiar 2° / 3 cm
(contra ruído de 0,54° / 1,9 cm). Estável entre 2° e 5°, e as duas corridas de
giro independentes concordam:

```
zona morta de GIRO   ≈ 0,095 rad/s    faixa 0,084 – 0,105
zona morta LINEAR    ≈ 0,023 m/s      faixa 0,020 – 0,025
```

A linear vem com ressalva: o número **sobe** com o critério (0,025 a 5 cm,
0,029 a 8 cm, 0,040 a 20 cm). Não tem patamar — na reta ele rasteja antes de
andar. O giro tem patamar, e por isso é o número firme dos dois.

### O achado que reescreve o modelo: `cmd_vel` é acelerador, não velocidade

Rajada única, `wz = 0,30 rad/s` por 1,5 s, pivô no lugar:

```
t=0,02  wz=+0,012      t=0,97  wz=+2,574
t=0,39  wz=+1,110      t=1,34  wz=+3,941   <- pico, 13x o comando
--- corte ---
t=1,85  wz=+1,613      t=2,39  wz=+0,211    t=2,75  parado
```

**O robô não persegue o comando: acelera enquanto o comando estiver ligado.**
Não estabiliza em valor nenhum. É o `open_loop` por inteiro — o comando vira
empuxo na placa, e não existe malha fechada de velocidade de roda.

Primeiros parâmetros para o Gazebo:

```
aceleracao angular  ≈ 2,9 rad/s²   (0 -> 3,94 em 1,35 s, comando 0,30)
desaceleracao       ≈ 2,2 rad/s²   (2,7 -> 0 em ~1,2 s, sem comando)
```

Isso explica tudo que parecia incoerente na sessão: as razões
realizado/comandado que mudavam de corrida (4,19x, 2,08x, 5,6x) não eram erro de
escala, eram a **rampa** — a razão depende de quanto tempo o comando ficou
ligado. E explica as "quase 4 voltas" com comando de meia volta, e o robô
batendo nas coisas quando rodei `--dur 12` com `--v 0.3`.

### Erros de método desta sessão, para não repetir

1. **Rodei o robô sem esperar o "pode"**, mais de uma vez. A regra 6 do
   `CLAUDE.md` é explícita e eu a tratei como formalidade sob pressa. Numa das
   vezes larguei uma bateria de `--dur 12 --v 0.3` (3,6 m por corrida) numa área
   preparada para pivô de 1 m de raio, e o robô bateu.
2. **Usei uma referência sem verificar o que ela era.** Um `ros2 param get
   open_loop` — dez segundos — teria evitado a sessão inteira.
3. **Tratei concordância entre dentes como validade.** Os quatro dentes
   concordavam porque mediam o mesmo artefato. Dispersão baixa não valida nada
   se o instrumento estiver ecoando a entrada.
4. **Discuti com o dono contra a evidência dele.** As três vezes em que o olho
   dele e o LIO foram confrontados, os dois concordaram e eu é que estava errado.

### Adendo da 4ª leva: o robô não anda reto, e é esse o defeito de verdade

As duas corridas de `degrau_giro` que rodaram por engano (`--dur 12 --v 0.3`,
as que fizeram o robô bater) são a evidência mais longa da sessão, e mostram o
que os ensaios curtos não pegaram.

**Com `cmd_wz = 0`, o LIO mede giro de −0,3 a −0,4 rad/s, sustentado.** O robô
arqueia sozinho. E o comando de curva não soma a isso: quando `+0,3` entra
(t=2,5 a 3,5), o giro realizado sobe de −0,32 para −0,02 — o comando apenas
**cancela** o desvio existente.

Casa com a assimetria dos encoders crus (`-70,1 rad` na esquerda contra
`-0,607 rad` na direita) e explica a batida: ele não atravessou a sala em linha
reta, curvou para dentro das coisas.

**Retratação dentro da retratação:** "`cmd_vel` é acelerador" não vale para a
reta. Nas mesmas corridas o linear ESTABILIZA em 0,21–0,30 m/s com comando de
0,30 — segue o comando. O disparo a 3,94 rad/s apareceu só no pivô parado, e é
provável que seja outra face do defeito de uma roda só, não um modelo de
atuador. Fica sem conclusão até a roda ser resolvida.

Ressalva que impede fechar o número: −0,3 rad/s por 8 s dariam ~137° de arco,
círculo de ~0,83 m de raio, e o robô se afastou 2,31 m da origem. Não fecham. O
desvio é real e grande; a magnitude ainda não está firme.

**Próximo passo, e ele não precisa de comando nenhum:** com o robô ligado, girar
cada roda com a mão e ler `/hoverboard/{left,right}_wheel/position`. Separa
"encoder morto" de "roda não acionada" em 30 segundos, sem o robô andar.

### Adendo 2 da 4ª leva: o desvio medido no atuador, e o driver que o robô não lia

Com a compensação religada e o sinal de realimentação por roda corrigido, quatro
rajadas curtas (1,0 s, volta a zero entre cada uma) pelo LIO:

| corrida | comando | v realizada | desvio sob comando | desvio na inércia |
|---|---|---|---|---|
| 1 frente | +0,10 | 0,173 m/s | −9,2° | −13,9° |
| 2 ré | −0,25 | 0,180 m/s | **+0,5°** | −7,7° |
| 3 frente (pós-ré) | +0,10 | 0,224 m/s | −6,9° | −20,1° |

**Patamar único, confirmado:** comandos de 0,10 e 0,25 deram 0,17–0,22 m/s. Na
faixa baixa o `cmd_vel` escolhe SENTIDO, não módulo — é a compensação de zona
morta inflando tudo até o mesmo teto. É o comportamento central que o Gazebo
tem de imitar.

**O desvio existe só para a frente, e é reprodutível** (−9,2° e −6,9°); de ré ele
anda reto. Virar a boba com uma ré antes NÃO removeu o desvio.

Gravando as duas rodas na rajada de frente:

```
 t=0,00  v_esq 0,000  v_dir 0,000   <- 0,4 s parado (latencia p/ destravar)
 t=0,40       +1,571       +1,571   <- arrancam JUNTAS
 t=0,98       +3,979       +3,246   <- dif +0,733
 --- corte ---
 t=1,26       +3,351       +2,199   <- dif AUMENTA: +1,152
 t=1,84       +0,733        0,000   <- direita parou, esquerda ainda gira
```

**A roda direita gira 20–25% mais devagar que a esquerda com o mesmo comando**
(~38 RPM contra ~31), e no corte a diferença cresce: a direita para meio segundo
antes. Isso é o desvio, medido no atuador em vez de inferido, e explica por que o
desvio na inércia era maior que o desvio sob comando.

Ressalvas: a velocidade vem quantizada em 1 RPM (0,105 rad/s); e as 100 unidades
que o driver manda viram ~38 RPM na roda, então o campo `speed` do firmware não
é RPM — a escala real não foi identificada.

**Hipótese aberta (do dono):** a boba. Ela não está descartada — arrasto
assimétrico carrega uma roda mais que a outra, e sem malha fechada isso vira
roda mais lenta. O teste que separa é gravar as rodas numa rajada DE RÉ: se lá
elas girarem iguais, é carga; se a direita seguir mais lenta, é placa/motor.

### O parâmetro que o robô nunca leu

Editei `hoverboard_driver.ros2_control.xacro`, commitei, deployei por bundle,
recompilei e relancei a base — e o robô ignorou. O `robot_base` declara o
`ros2_control` do hoverboard **inline** no `robo2.urdf.xacro` e nunca inclui o
xacro do pacote do driver. Os `feedback_sign` só pegaram por eu tê-los posto
como default no C++.

Custou três ciclos de deploy até eu olhar o `robot_description` de verdade.
Parâmetro novo do driver vai no `robo2.urdf.xacro`, e agora há um aviso no
próprio bloco.

Também anotado: `pkill -f ros2_control_node` dentro de um comando ssh casa com a
**própria linha de comando do ssh** e mata a sessão antes de relançar a base.
Matar por PID, ou usar o truque do colchete.

### Adendo 3 da 4ª leva: o par de pivô, e a repetição que corrigiu os números

Repetidas as rajadas de reta com as rodas gravadas (n=2 por sentido), as médias
sobre a janela 0,6–1,0 s corrigem o que eu tinha afirmado por olhômetro em cima
do pico:

| corrida | esq vs dir sob comando | tempo até parar (esq / dir) |
|---|---|---|
| frente #1 | +11,3% | 0,90 s / 0,70 s |
| frente #2 | +12,0% | 1,00 s / 0,62 s |
| ré #1 | +7,2% | 0,70 s / 0,76 s |
| ré #2 | −0,8% | 0,67 s / 0,67 s |

Não são os "20–25%" que eu disse: são **11–12% de frente e ~0% de ré**. E a
frenagem só é desigual indo para a frente (esquerda demora 0,2–0,4 s a mais).
Isso derruba a minha afirmação de que "aparece nos dois sentidos, logo não é a
boba" — a assimetria da RETA é dependente de sentido, o que mantém a boba como
candidata. **Confirmado a olho pelo dono: de ré sai reto, de frente pende para
a direita.** Aceito como fenômeno medido; a causa fica em aberto.

**Par de pivô** (`wz = ±0,30`, 1,0 s, rodas gravadas):

| | `+0,30` | `−0,30` |
|---|---|---|
| giro sob comando | +60,2° | −48,9° |
| giro na inércia | +87,5° | −101,2° |
| **giro TOTAL** | **+147,7°** | **−150,0°** |
| realizado/comandado | 3,50× | 2,84× |
| deslocou o centro | 0,139 m | 0,071 m |
| esq vs dir | +15,9% | +11,4% |
| esq parou em | 1,20 s | 0,59 s → dir |
| dir parou em | 0,59 s | 1,35 s |

Para o simulador:

1. **O giro total é simétrico** (147,7° contra 150,0°) — o Gazebo não precisa de
   assimetria de rotação.
2. **A esquerda é 11–16% mais forte nos DOIS sentidos de giro** — diferente da
   reta, onde só aparece indo para a frente.
3. **Quem para por último é sempre a roda que gira para TRÁS.** Regra limpa.
4. **60% do giro acontece depois do corte** (~90–100°), e o pivô não é puro:
   sai 7 a 14 cm do lugar.
5. O giro também é inflado pela compensação: 2,8–3,5× o comandado.

Falha de instrumento anotada: o `rajada_rodas.py` gravava só `cmd_v`, então o
CSV `2026-07-31-pivo-wz030.csv` não registra o `wz` comandado (está só no nome
do arquivo). Corrigido para as corridas seguintes.

### Adendo 4 da 4ª leva: o patamar fecha o modelo, e o que AINDA falta

Rajada de `v=0,80` por 0,40 s saiu **inconclusiva por erro de desenho meu**: a
latência para destravar é ~0,35 s e eu escolhi comando de 0,40 s, sobrando 0,16 s
de acionamento. O pico de 40 RPM aconteceu já na inércia. Andou 4,7 cm sob
comando, 25,9 cm no total.

A resposta veio do código, sem mexer no robô. A compensação só age com
`mx < 100`, e para `v = 0,80`:

```
roda = 0,80/0,080 = 10,0 rad/s   ->   set_speed = 10,0/0,10472 = 95,5   (<100)
```

Ainda é inflado. O patamar termina em `100 unidades = 10,472 rad/s = 0,838 m/s`,
e o teto do robô é 1,0. **Todo comando entre ~0,008 e ~0,838 m/s vira a mesma
coisa na placa** — o patamar cobre a faixa útil inteira. Bate com o medido (0,10
e 0,25 deram a mesma velocidade).

Modelo do atuador para o Gazebo:

```
|cmd| < 0,008 m/s     -> nao move
0,008 a 0,838 m/s     -> mesma velocidade (~0,2 m/s medidos), ~0,35 s de latencia
> 0,838 m/s           -> comando passa proporcional (NAO TESTADO)
```

**A zona morta, e são duas.** Efetiva (compensação ligada, releitura pelo LIO por
deslocamento de pose): linear ≈ **0,023 m/s** (faixa 0,020–0,025) e giro ≈
**0,095 rad/s** (faixa 0,084–0,105). Conferem com o previsto pelo código (0,0084
e 0,062) dentro do atraso de detecção da rampa. O linear é o fraco: **não tem
patamar** (0,029 a 8 cm de critério, 0,040 a 20 cm), então é "onde começou a
rastejar". O giro tem patamar e duas corridas concordando. Crua (compensação
desligada): só bracketada entre **0,25 e 0,5 m/s**.

**O que NÃO foi feito, para não fechar a sessão fingindo completude:**

- repetição: linear n=1, giro n=2, pivô n=1 por sentido. O protocolo pede 3.
- `curva` sustentada (giro realizado × comandado em movimento, e derrapagem).
- `reta` com cutucão (se o rumo assenta ou foge após perturbação).
- `degrau_giro` / `a_dec` angular, que o `collision_monitor` e o seguidor pedem.
- comportamento acima de 0,838 m/s.

**Dívida de método:** o `tools/banco` pressupõe que comando sustentado dá
velocidade sustentada. Com o patamar único isso é FALSO na faixa baixa — rodar o
protocolo como está mede o patamar, não o robô. Os ensaios de zona morta
precisam ou de rampa repensada, ou de rodar com a compensação desligada, que é
onde a zona morta física existe.

### Adendo 5 da 4ª leva: o LIO estava certo o tempo todo, e o instrumento era eu

Girei até **o LIO** acusar 180° e cortei; ele girou mais na inércia. As três
fontes no fim:

```
olho do dono   ~270°  ("meia volta + 1/4, parou de lado")
LIO             264,6°
rodas           257,5°
```

**O LIO está validado** — terceira conferência independente do dia contra o olho
do dono, agora com referência angular precisa em vez de "uns 190°". O dono
insistiu nisso desde o começo da sessão e estava certo.

**Retratação do "fator 1,25".** Eu havia mostrado LIO ÷ rodas ≈ 1,22–1,29 em
todas as corridas, translação e rotação, e concluído erro de escala no encoder.
Era buraco de gravação meu:

```python
finally:
    for _ in range(10): n.manda(0.0, 0.0); time.sleep(0.02)   # 0,2 s SEM gravar
```

Esses 0,2 s são exatamente o trecho em que o robô ainda está em velocidade quase
máxima logo após o corte. A integral das rodas os perdia; o LIO, medido de ponta
a ponta, não. A 0,3 m/s dá ~6 cm — e as diferenças observadas eram 6,7 e 7,2 cm.
O teste do 180° integra continuamente e as duas fontes fecham em 2,8%.

Consequência: **as distâncias e velocidades medidas pelo LIO voltam a valer**,
inclusive a zona morta linear de 0,023 m/s. Corrigido o `rajada_rodas.py`.

Fica em aberto, sem explicação: em algumas corridas o `/Odometry` traz episódios
de amostras ~1,4 m deslocadas (10–20% das amostras, valores repetidos entre
corridas). Não é ruído aleatório e não afeta o yaw. Corrida com episódio desses
tem o deslocamento inutilizado e deve ser descartada — hoje isso atingiu
`pivo-wz030-r2` e `curva-v010-wz030`.

### O placar de instrumentos desta sessão

Três vezes eu acusei o sensor e três vezes o defeito era meu:

1. "ruído de 0,033 rad/s" → era `JANELA_S` de 0,2 s sobre pose a 10 Hz.
2. "o LIO fabrica movimento" → eu comparava com odometria em `open_loop`, que é
   o comando ecoado.
3. "o LIO infla 25%" → buraco de 0,2 s no meu logger.

E quatro vezes o olho do dono arbitrou certo: o giro à esquerda, o "no giro ele
não se mexeu", o "de ré reto e de frente pendendo", e os ~270°. **Num banco de
ensaios sem padrão de referência, a testemunha humana é o instrumento mais
confiável que existe** — e é barata. Usar mais, e mais cedo.

### Adendo 6 da 4ª leva: os "saltos do LIO" eram TRÊS pilhas rodando juntas

A `curva` foi refeita e saiu contaminada de novo (salto de 1,344 m, yaw do LIO
+18,0° contra +45,5° das rodas). Em vez de queimar mais corrida, fui olhar o que
estava vivo no NUC:

```
ros2_control_node      : 1
livox_ros_driver2_node : 3     <-- 6273, 7043, 7858
fastlio_mapping        : 3     <-- 6274, 7044, 7859
```

**Três pilhas de localização completas em paralelo**, publicando as três em
`/livox/lidar`, `/livox/imu` e `/Odometry`. Órfãs das minhas derrubadas de base:
usei `pkill -f ros2_control_node` dentro do comando ssh, o padrão casou com a
**própria linha de comando do ssh** e matou a sessão antes de relançar. Repeti
três vezes.

Três FAST-LIO com origens diferentes publicando no mesmo tópico é exatamente a
assinatura observada: saltos de magnitude quase CONSTANTE (~1,33 a 1,41 m) entre
corridas diferentes — que eu, erradamente, li como "o sensor perde rastreio".

Depois de matar os órfãos por PID e relançar UMA pilha:

```
antes (3 pilhas)  : saltos de 1,35 m
so matando orfaos : salto 0,140 m, deriva 0,078 m em 15 s  (mapa ja sujo)
apos relancar     : salto 0,0051 m, deriva 0,0018 m em 15 s, yaw -0,10°
```

**O LIO é excelente.** Melhor que a medida da manhã. Todo o episódio de
"instabilidade do sensor" foi sujeira que eu deixei no robô.

Procedimento, para não repetir: matar por PID, conferir com `ps` que a lista
saiu **vazia**, e só então lançar — em chamada ssh separada. Antes de confiar em
qualquer medida de `/Odometry`, verificar que existe **exatamente um**
`fastlio_mapping` e **um** `livox_ros_driver2_node`.

Corridas a descartar por contaminação: `pivo-wz030-r2`, `curva-v010-wz030`,
`curva-r2`, `zm-linear-r2` (esta também falhou por gatilho de amostra única).

### Fechamento da 4ª leva: 7 corridas vazias, e o que fica para a próxima

Tentadas as versões encurtadas dos passos 3, 4 e 5 (a_dec por pivô a `wz` 0,3 /
0,6 / 1,0; curva a `v` 0,2 / 0,4 / 0,6; aceleração a `v` 0,6). **As sete saíram
vazias** — zero pose, zero roda girando: a rede caiu e o NUC ficou inalcançável.
O robô não se mexeu em nenhuma. Os arquivos foram apagados para não sujarem o
conjunto.

**Defeito de instrumento que isso expôs, e é o mais perigoso de todos:** os
scripts de rajada **não percebem que o robô sumiu**. Publicam em `cmd_vel`,
gravam linhas em branco e terminam imprimindo `COMANDO ... 205 amostras`, com
cara de sucesso. Se a queda tivesse acontecido no meio de uma corrida boa, o
número teria vindo pela metade sem aviso. **Antes da próxima sessão: checar
`/Odometry` vivo no início e no fim de cada rajada, e abortar se não estiver.**

### Onde o banco realmente está: 2 passos de 6

| passo | corridas | estado |
|---|---|---|
| 1 — zona morta de giro | 1 | ✅ feito |
| 2 — zona morta linear | 1 | ✅ feito |
| 3 — degrau de giro (`wz` 0,3/0,6/1,0) | 3 | ❌ nenhuma |
| 4 — curva (`v` 0,2/0,4/0,6) | 3 | ❌ nenhuma |
| 5 — aceleração linear | 1 | ❌ |
| 6 — reta com cutucão | 4 | ❌ nenhuma |

O `a_dec` (~3,05 rad/s²) e a curva (`v=0,10`) que estão no `MODELO_ROBO2.md` são
**substitutos** derivados de rajadas curtas, não os ensaios 3 e 4.

**Os passos 3, 4 e 5 precisam ser REESCRITOS antes de rodar.** Os três varrem
velocidade — "quanto ele curva a 1×, 2×, 3×" — e 0,2 / 0,4 / 0,6 m/s caem todas
dentro do patamar da compensação, então as três dariam o mesmo resultado. Do
jeito que estão, não conseguem responder à própria pergunta neste robô. A
varredura tem de subir acima de 0,838 m/s, onde o comando volta a ser
proporcional — e isso exige espaço que a bancada de hoje não tinha.

O passo 6 continua válido como está e é o mais importante dos que faltam: ele
pergunta se o rumo se recupera de uma perturbação ou foge, e o desvio de 9° em
18 cm que medimos torna essa pergunta urgente. Precisa de corredor (4 corridas
de ~4 m).

### O limite honesto do modelo de hoje

Todas as corridas boas são **rajadas de ~1 s e ~20 cm**. As duas únicas longas
(12 s) são justamente as que bateram, e rodaram com o LIO poluído pelas pilhas
órfãs. Então o `MODELO_ROBO2.md` está aferido em **arranca-e-para**, não em
percurso sustentado — e percurso é o que um seguidor faz o tempo todo. Duas
corridas limpas num corredor fecham isso: o passo 6 e uma reta longa.

## 🎛️ 2026-08-01 — O atuador medido entra no simulador, e a decisão 005 cai

Sessão sem robô, em cima dos CSV de 31-07. O simulador tinha uma placa que
engolia comando pequeno; o robô tem outra coisa, e muito pior. Agora os dois
erram igual.

### O que eu conferi sozinho, antes de mexer

Refiz as contas dos CSV em vez de aceitar o laudo. A **zona morta de giro
(0,091–0,096 rad/s) é firme** — recalculei por deslocamento de yaw com critério
de 2°, 3° e 5° e deu 0,091 / 0,096 / 0,096, com os 4 dentes concordando.

O **patamar** também se confirma, e um pouco maior do que estava escrito:
comando de 0,10 m/s virou **0,26–0,28 m/s de borda** nas quatro rajadas. A
assimetria de frente é consistente (+11,3% e +12,6%); a de ré não é (+6,7% e
−0,9%), o que sustenta a leitura de que ela depende do sentido.

E extraí o que faltava para fechar o modelo do atuador:

```
latencia       = 0,273 s   (n=4, faixa 0,24-0,31)
patamar        = 3,72 rad/s de roda = 0,297 m/s de borda
aceleracao     = 5,44 rad/s²  (0,435 m/s²)
desaceleracao  = 4,66 rad/s²  (0,373 m/s²)
escala real    = 0,0372 rad/s por unidade  (o driver assume 0,10472)
```

**A escala é o achado que fecha a história**: o driver superestima a roda em
**2,8×**. É por isso que o robô sempre andou mais rápido do que se pediu, e é o
mesmo 2,8× que aparece no patamar.

### Onde eu leio diferente do laudo de 31-07

**A "zona morta de giro" não é atrito, é aritmética do driver.** A compensação
dispara em `mx > 1.0`, o que dá `wz > 0,0621 rad/s`. Medimos 0,091–0,096, e a
diferença de 0,03 é exatamente a latência de 0,27 s sobre uma rampa de
0,075 rad/s por segundo. O número é reprodutível e útil como propriedade **do
sistema**, mas se move se alguém mudar `deadband_speed` ou o raio da roda. O
atrito de verdade segue não medido.

**A pergunta do pivô foi dissolvida, não respondida.** Com a compensação ligada,
qualquer `wz` acima de 0,062 pivota, na velocidade do patamar. A aritmética que
dizia "pivotar exige 0,96 rad/s contra teto de 1,0, folga de 4%" ficou sem
objeto. O pivô existe; o que não existe é **controle da velocidade dele**. Isso
mexe na premissa da decisão 009.

### A decisão 005 não sobrevive ao atuador medido

Passei a própria lei da 005 pelo modelo, offline:

```
        wz = sinal(e)·min(wz_max, √(2·a_dec·|e|))

 erro de rumo |  a lei PEDE | a placa ENTREGA | fator
         1°   |    0.326    |        2.204    |  6.76x
         2°   |    0.461    |        2.204    |  4.78x
         5°   |    0.730    |        2.204    |  3.02x
        10°   |    1.000    |        2.204    |  2.20x
        45°   |    1.000    |        2.204    |  2.20x
       180°   |    1.000    |        2.204    |  2.20x
```

**A lei produz 8 valores distintos; a placa entrega 1.** De 1° a 180° de erro de
rumo o giro é o mesmo, e é 2,2× maior que o máximo que a lei jamais pediria. A
frenagem de rumo — o resultado central da decisão 005, validado em 10 corridas
de simulador — **não existe neste robô** enquanto a compensação estiver ligada.
O mesmo vale para `v = √(2·a_lin·dist)` da aproximação, e o `v_piso` fica sem
sentido: não há velocidade abaixo do patamar para se estar.

Em uma frase: **o contrato de que `cmd_vel` está em m/s é falso em toda a faixa
que a navegação usa**, e é sobre esse contrato que a movimentação inteira foi
escrita.

### O simulador agora erra como o robô erra

`placa_simulada.py` reescrito. Reproduz a conta do driver linha a linha
(escala as duas rodas por `k = deadband_speed/mx`), depois aplica a escala real
do firmware, a latência e a assimetria por sentido. Três modelos:
`medido` (padrão), `cru` (compensação desligada, onde a zona morta física
aparece) e `ideal` (fio, para comparar).

Provado no Gazebo, mesma ordem de movimento nas duas placas:

```
comando      placa ideal        placa medida
0,10 m/s ->  0,200 m em 2 s     0,548 m
0,25 m/s ->  0,500 m            0,541 m
0,50 m/s ->  1,000 m            0,541 m     <- as tres iguais
```

`sim.launch.py placa:=medido|cru|ideal`, e o mesmo em `pilha.launch.py`. O
parâmetro `zona_morta:=` saiu — não descrevia mais nada.

### Um tropeço meu, que é o mesmo do laboratório

A primeira rodada da prova deu placa medida ≈ placa ideal, o que não fazia
sentido. Eram **quatro `placa_simulada` órfãs** acumuladas no dia, mais quatro
pontes de `/Odometry`, de lançamentos que eu derrubei com `pkill` de padrão
largo. Exatamente o defeito das três pilhas do laboratório, na minha máquina.
A corrida trazia `Failed to configure controller` no log e eu não tinha olhado.

Passou a fazer parte do procedimento: contar `placa_simulada` viva **antes** de
medir, e conferir `Failed to configure` no log. Está no script de prova.

### O que NÃO foi feito

A comparação da pilha inteira (Nav2 + seguidor) nas duas placas **não rodou**:
o `base_link` não aparecia na TF e os costmaps reclamavam de raio de inflação
menor que o inscrito (0,300 contra 0,363 — o footprint da trena é maior que o
que o `nav2.yaml` supõe). Fica como próximo passo, e o aviso do costmap é um
defeito de verdade, anotado.

419 testes verdes (eram 407), com 8 novos travando o modelo do atuador —
inclusive o do colapso da lei da 005, que é a afirmação mais forte desta entrada.
## 🎯 2026-08-04 — O bloqueio era do instrumento, e o robô anda em círculo

Sessão de bancada com o robô ligado, conduzida por ssh no NUC; o dono só executa
o físico. **Nove corridas.** O banco foi de 2 passos de 6 para 4, e o resultado
principal não estava no protocolo: **o robô descreve um círculo indo para a
frente, e a causa depende do sentido de marcha.**

### O briefing estava desatualizado, e seguir o checklist quebraria o robô

O dono abriu a sessão pedindo para medir a zona morta ("item nº 1, não foi
medida") e para seguir o `CHECKLIST_ROBO.md` na ordem, sem pular — incluindo
**aplicar o swap esquerda/direita**. As duas premissas são do fim de 30-07 e a
sessão de 31-07 à tarde já as tinha desmentido. O checklist é da *manhã* de
31-07: ele é anterior à própria sessão que preparava.

Conferido no repo antes de tocar em nada: a zona morta está medida (giro 0,095
rad/s, linear 0,023 m/s), o swap foi aplicado (`368ea13`) e **revertido**
(`595cf80`), e o YAML de hoje está sem swap — o estado correto. Aplicar aquele
script quebraria um robô que está certo. **Parado e reportado antes de agir**,
que é a regra 1 do `CLAUDE.md` valendo contra o pedido do próprio dono.

### O "giro espelhado" de 30-07 era enrolamento de ângulo

Antes de rodar o cutucão, olhei o que ele calcula:

```python
giro = math.atan2(math.sin(yaw() - a0), math.cos(yaw() - a0))
```

Isso **enrola em ±180°**. E o cutucão manda `+0,6 rad/s por 2,0 s` — com o
patamar da compensação, muito mais que meia volta. A conta fecha exata:
`281,5° − 360° = −78,5°`, que é o número do bloqueio de 30-07.

Rodado hoje com o dono de testemunha: leu **−71,0°**, e ele viu **o nariz ir
para a esquerda varrendo bastante**. São `289°` enrolados. O robô gira certo.

### E a retratação de 31-07 sobre o LIO era ela própria incorreta

A 3ª leva de 31-07 concluiu que o **yaw do LIO vem com sinal invertido**, a
partir de "o LIO reportava −68,2° com rótulo direita". Mas `−68,2 + 360 =
291,8°` — é o mesmo enrolamento, diagnosticado como sinal trocado.

O teste do sinal, com o dado de hoje: giro físico anti-horário de 289°. Se o
yaw estivesse certo, `atan2` devolve −71° (foi o que deu); se estivesse
invertido, devolveria +71°. Conferido também no dado cru de 31-07, desenrolando:

```
pivo-wz030.csv     comando +0,30  ->  yaw desenrolado  +147,7°
pivo-wz030neg.csv  comando −0,30  ->  yaw desenrolado  −150,0°
```

Sinal do comando e sinal do yaw **concordam**. E esses números já estavam na
tabela do diário de 31-07 — ninguém cruzou as duas partes do próprio registro.
**O LIO está certo.** É a quarta vez que ele é acusado e a quarta vez que o
defeito é do instrumento de leitura.

### O resultado do dia: o arco é do robô, e 88% dele é a boba

O passo 6 pergunta se o rumo se recupera de uma perturbação. **Não dá para
perguntar isso neste robô**, por dois motivos independentes que a primeira
corrida expôs: não existe reta de referência (ele faz círculo), e o pulso de
perturbação dura 0,5 s contra uma latência de placa de ~0,5 s — não perturba
nada (wz médio −0,405 antes, −0,358 durante, −0,369 depois).

Rodadas então retas puras, medindo **curvatura**. Com `n=2` matched por sentido:

```
FRENTE   média −0,817 1/m   raio  1,22 m   faixa −0,73 a −0,90
RÉ       média −0,098 1/m   raio 10,19 m   faixa −0,08 a −0,12
                                              razão frente/ré = 8,3x
```

**Controle de piso, e ele funcionou por acaso feliz.** O dono posicionou a
corrida de ré com o bico a 180°, o que faz o robô andar na *mesma direção do
mundo* que a corrida de frente, sobre o mesmo pedaço de chão, com o corpo
girado. Se o arco fosse caimento, a força é fixa no mundo e a curvatura **no
corpo** trocaria de sinal. Ela saiu negativa nas **quatro** corridas.
**O arco é do robô, não da sala.**

O que isso exclui: motor ou placa fraca de um lado daria a mesma curvatura nos
dois sentidos. Sobra causa dependente do sentido de marcha — a assinatura de uma
roda boba, arrastada atrás indo para frente e dianteira indo de ré. Encaixa com
os encoders de 31-07 (esquerda 11–12% mais rápida **só** de frente, ~0% de ré),
que medem no atuador e não passam por piso nem por rumo.

**O dono corrigiu uma frase minha, e a correção melhorou o resultado**: eu
escrevi "de ré ele anda praticamente reto"; ele disse que a ré desvia sim, muito
menos, e está certo — raio de 10 m ainda dá 70–90° em 10 m de percurso. Isso lê
como **duas parcelas somadas**: ~−0,10 1/m constante nos dois sentidos e ~−0,72
1/m só de frente, ou seja **88% do arco de frente é o termo da boba**.
Consequência de projeto: consertar a boba não deixa o robô reto.

### O `a_dec` medido, e ele não é constante

O passo 3 roda apesar do patamar da compensação — o `a_dec` é medido **com o
comando em zero**, e compensação só age com comando. Rodado como **pivô puro**
(`--v 0`, não o `--v 0.3` do protocolo): com a curvatura de frente de hoje,
andar durante o ensaio injetaria −0,25 rad/s de guinada espúria que continua
depois do corte, e o `a_dec` sairia errado — o defeito disfarçado de física.

Calculado do yaw **desenrolado**, porque o `medir.py` usa o mesmo `atan2`. `n=3`:

```
a_dec EFETIVO  média 3,26   faixa 2,68–4,32   dispersão 50%
a_dec CAUDA    média 1,03   faixa 0,88–1,12   dispersão 24%
pico de wz     média 2,33   faixa 2,23–2,51   dispersão 12%
```

**O `a_dec` efetivo não serve como constante de projeto** — espalha 50% entre
corridas iguais, porque é `wz²/(2·Δθ)` e o pico entra ao quadrado. Os 3,05 do
`MODELO_ROBO2.md` caem dentro da faixa dele, então o substituto de rajada curta
não errou o *valor efetivo*; errou o *uso*.

O que o seguidor precisa é a **cauda: ~1,0 rad/s²**, onde o robô tem de assentar
no rumo e desacelera 3× menos que o substituto diz. E é o lado seguro do erro
pelo próprio achado de 27-07 ("errar para baixo é de graça; para cima traz o S
de volta").

Latência depois do corte, medida nas três: **0,40 / 0,56 / 0,60 s**, mais que os
~0,35 s que o registro trazia.

### Erros meus nesta sessão

1. **Dimensionei a primeira corrida só pela distância à frente.** A trava de
   `--espaco` é **radial** e, num robô que faz círculo de 0,9 m, ele varre 1,8 m
   para os lados sem "estourar" nada. O corredor era estreito e **o robô bateu
   numa cadeira**. Pior: quem disparou a trava foi a odometria em `open_loop`,
   que achava ter andado 2,98 m em linha reta enquanto o LIO sabia que ele estava
   a 1,79 m da origem. Cortou pelo motivo errado. Corrigido nas seguintes com
   `--espaco 1.2`, que limita o **disco varrido**.
2. **Comparei um par não-matched e escrevi conclusão em cima dele.** As corridas
   `-a` partiram de rumos 89° diferentes, o que deixa caimento de piso entrar. Só
   vi ao olhar o rumo inicial no CSV, depois de já ter commitado. Corrigido pelo
   par `-b`.
3. **Chamei de "dispersão de 57%" o que era diferença de configuração** (a `-a`
   rodou com `--espaco 3.0`, com pulso e por 3,74 m). A dispersão matched é 21%.

### O que ficou de instrumento, e uma dívida paga antes de medir

Antes de subir o robô, consertado o defeito que perdeu 7 corridas em 31-07: o
`ensaio.py` guardava a última mensagem e nunca olhava **quando** ela chegou —
fonte morta congelava a pose, a derivada dava 0,0 (leitura plausível, não erro)
e a corrida fechava inteira com cara de sucesso. Agora aborta em `--sem-dado`
(1,0 s) e sai com código 1, que o `sessao.py` já sabia tratar e nunca recebia.
4 testes; 415 verdes.

**Ainda por consertar:** o `atan2` que enrola, no cutucão do `sessao.py` e no
`medir.py`. É o defeito que custou a sessão de 30-07 inteira e quase custou a de
hoje.


### Adendo — encaixe com a entrada de 08-01, escrita em outra máquina

As entradas de 08-01 e 08-04 foram escritas em paralelo, em máquinas
diferentes, sem uma saber da outra. Juntando no merge, três coisas:

**A confirmação cruzada, e é a mais valiosa.** 08-01 derivou **do código do
driver** que a placa entrega um `wz` único de **2,204 rad/s**. 08-04 mediu no
robô, com o LiDAR, picos de **2,226 / 2,514 / 2,253 rad/s**. Duas rotas
independentes — leitura de código e medida em hardware — no mesmo número. O
modelo do atuador de 08-01 deixa de ser derivação e passa a ser **modelo
validado**.

**As duas "latências" não brigam: são fenômenos distintos.** 08-01 mede 0,273 s
para o robô *começar* a andar depois do comando. 08-04 mede 0,40–0,60 s entre o
comando *zerar* e o `wz` chegar ao pico — quanto a placa **continua empurrando
depois de desligada**. Atraso de liga e atraso de desliga, os dois reais, e o de
desliga é o maior. Registrar como dois números, não como um corrigindo o outro.

**E o `a_dec` de 08-04 ganha peso com a 005 em xeque, em vez de perder.** Meu
laudo de hoje dizia "o seguidor deve usar a cauda, ~1,0 rad/s²" — escrito
assumindo que existe uma lei de frenagem para alimentar. Com a 005 em xeque essa
premissa cai, mas a conclusão não: se `wz` não é modulável, a **única** alavanca
que sobra é decidir *quando cortar*, e o que acontece depois do corte é
exatamente o que o `a_dec` descreve. Ele deixa de ser ganho de controlador e
vira **limite de precisão de rumo da máquina**: partindo de 2,33 rad/s são ~47°
de sobrepasso (faixa 42–53°) em qualquer pivô comandado, mais o que girou sob
comando. Piso, não sintonia — nenhum ganho conserta isso.

**E uma correção de interpretação que veio de lá:** a "zona morta de giro" de
0,095 rad/s continua certa como número e muda de significado — é o disparo da
compensação (`mx > 1.0` → `wz > 0,0621`) somado à latência sobre a rampa, não
atrito. Descreve o sistema, não a máquina. **O atrito segue não medido**, e com
a compensação ligada 08-04 também não conseguiu medi-lo.

## 🪞 2026-08-04 (2ª leva) — O simulador passa a arcar como o robô arca

Sessão sem robô, em cima dos seis CSV de reta da leva da manhã. É o passo 12
do ESTADO (calibrar o simulador contra o robô), e ele fechou — com um defeito
meu no meio que só a corrida no Gazebo pegou.

**Dado:** `docs/dados/2026-08-04-aceitacao-simulador/` (CSV + `leitura.txt`).

### O ponto de partida não era o que o ESTADO dizia

O item 12 afirmava que o simulador reproduzia "~1×" de assimetria entre frente
e ré. Isso era verdade em **28-07**; a reescrita do `placa_simulada.py` de
01-08 já tinha posto assimetria dependente de sentido. Medido de verdade,
rodando as funções do nó:

```
                 simulador de ontem      robô (04-08)
frente               -0,419 1/m           -0,838 1/m
ré                    0,000               -0,113
razão                    ∞                    7,4x
```

Não era 1×, era **infinito** — ré perfeitamente reta. E errava nas duas
pontas em sentidos opostos do erro.

### Refiz as medidas do robô do CSV cru, e o registro se sustenta

Par matched (b,c), `curvatura = Δyaw/caminho`: frente **−0,838**, ré
**−0,113**, razão **7,4×**, parcela só-de-frente **86%**. Contra o registrado
(−0,817 / −0,098 / 8,3× / 88%). A diferença é janela de amostras e cabe dentro
dos 21% de dispersão do próprio robô. **O `ambiente.txt` de manhã é confiável.**

### O achado: metade do arco de frente não está nas rodas

Invertendo `curvatura = −2a/(L(2+a))`, a assimetria de roda necessária é
**24,8% de frente**. O encoder de 31-07 mediu **11–12%**. Ou seja: o corpo arca
o dobro do que as velocidades de roda explicam. É a quarta evidência
independente apontando para um termo de **corpo** (a boba), e num nível que nem
31-07 nem a leva da manhã tinham cruzado.

Consequência escrita no cabeçalho do nó: o arco entra **disfarçado de roda**,
porque a placa só tem rodas para escrever. O **encoder simulado passa a
mentir** (25% onde o robô tem 11–12%), o que é inofensivo hoje (`open_loop`) e
**quebra no dia em que ligarem `open_loop: false`** — que é item aberto.

### 🔴 O defeito: duas convenções de curvatura, e a ré espelhada

Primeira corrida de aceitação no Gazebo:

```
frente  -0,654 1/m   sinal certo, 80% da magnitude
ré      +0,088 1/m   SINAL TROCADO (alvo -0,098)
```

Causa: inverti os parâmetros com `curvatura = wz/v` (v **com** sinal) enquanto
a bancada mede `Δyaw/caminho` (caminho **sem** sinal). De frente as duas
concordam; **de ré elas dão sinais opostos**. O robô simulado arcava para o
lado errado indo de ré.

**A suíte estava verde** — porque o helper do teste usava a mesma convenção
errada do defeito. É o mesmo tipo de erro da régua do planner em 29-07: régua e
objeto medidos juntos, com o mesmo viés, e o erro fica invisível. **Só a
corrida no Gazebo pegou.**

Conserto de raiz: os parâmetros do nó deixaram de ser assimetria e passaram a
ser a **curvatura medida** (`curvatura_frente`, `curvatura_re`, os números da
bancada copiados sem conversão). A assimetria de roda é **derivada**:

```
a = -2cL / (2s + cL)          s = +1 frente, -1 ré
```

O `s` no denominador faz a assimetria sair **negativa na ré** sozinha. Ninguém
mais escreve sinal à mão, e o arquivo passou a conter os números da bancada em
vez de números convertidos.

### A derrapagem do Gazebo virou parâmetro nomeado

Com o sinal certo, o corpo simulado ainda arcava **80%** do que a placa pedia
(−0,654 contra −0,817). Bate com o déficit de giro medido em 29-07 (79–86%) —
é derrapagem do contato simulado, **não é do robô**. Entrou como
`rendimento_giro: 0.80`, com o aviso de que no robô real o equivalente é 1,0 e
de que mexer em atrito/massa/planta do Gazebo obriga a refazer esta corrida.

### O resultado, n=3 por sentido

```
                SIMULADOR        ROBÔ (04-08)
frente          -0,817 1/m       -0,838 1/m
ré              -0,109           -0,113
razão               7,5x             7,4x
```

As três grandezas caem dentro da dispersão do próprio robô.

### Duas dívidas de instrumento pagas no caminho

- **`ensaio.py --topico`**: ele publicava direto em
  `/hoverboard_base_controller/cmd_vel`, que no simulador **passa por fora da
  placa fingida**. Era a limitação anotada em 31-07 ("o Gazebo provou o
  mecanismo, não o número"). Sem essa flag a corrida de aceitação mediria um
  robô sem atuador.
- **O dublê do `test_placa_simulada.py` copiava os defaults do nó à mão.**
  Mudei o fonte e os 8 testes seguiram verdes descrevendo o robô antigo. Passou
  a ler o `declare_parameters` do fonte via `ast`; mutação confirma (repondo
  0,12, dois testes quebram).

### A curvatura virou instrumento (`medir.py curvatura`)

Ela só existia como prosa no `ambiente.txt` da manhã. Agora roda igual em CSV
do robô e do simulador, que é o que torna os dois comparáveis, e tem regressão
contra os seis CSV crus versionados. Mutação: trocando o acúmulo de yaw pelo
`atan2` entre pontas, o arco de 242° lê **+0,555** — magnitude e sinal errados,
o defeito de `7a0c364`. O teste pega.

**440 testes verdes** (eram 429).

### O que NÃO fechou

1. **Dispersão (12c) segue aberta, e agora com número**: o simulador dá 4% de
   dispersão de frente contra 21% do robô, e **0%** na ré contra 37%. Ele é
   determinista demais e faz qualquer controlador parecer mais repetível do que
   vai ser.
2. Medido só a **0,25 m/s**, dentro do patamar. Acima de 0,838 m/s ninguém
   mediu nada, nem no robô nem aqui.
3. O **mecanismo** continua fora (BO-4): o modelo reproduz o sintoma.
4. Percurso de 1,2 m. A corrida de 3,7 m do robô deu arco mais forte (−1,15):
   a hipótese "o arco aperta com a distância" não foi testada em nenhum dos
   dois lados.

## 🪞 2026-08-04 (3ª leva) — O teto de aceleração angular e o atraso de desliga

Continuação da aceitação, investigando por que o pico de wz saia 5× menor no
simulador (0,45 contra 2,33 rad/s do robô), mesmo com a placa now modelada.

Suspeitei do `angular.z.max_velocity: 1.0` do diff_drive_controller (sabia que
no robô ele cede à compensação da placa e a deixa subir para ~2.2). No
simulador a compensação é um nó SEPARADO que vem ANTES do controlador,
então o corte caía DEPOIS dela e desfazia o que ela faz — o patamar
simplesmente não passava.

Levantei para 3.0. O pico subiu de 0,45 para 2,25 — agora bate com o robô.

Mas com aceleração angular em 1,5 rad/s² (planta normal), o sobrepasso ficou
94° contra 49° do robô — 2× maior. Investigando: a placa real **empurra
0,51 s DEPOIS do comando zerar** (latência de desliga), medido em 04-08. No
simulador com só o parâmetro `latencia` ela para em **0,24 s** — metade. Sem
modelar esse atraso de desliga, o Gazebo desacelera mais rápido do que a
máquina real.

**Deixa para depois**: é mudança estrutural (entra no loop da placa fingida,
não é parametrização) e o passo 1 (arco) já fechou — as três medidas rodam.

## 🪞 2026-08-04 (4ª leva) — Os dois "bate" eram de plantas diferentes

O dono pediu para ver funcionando, e a desconfiança estava certa: o resumo da
3ª leva somava dois ✅ que nunca valeram juntos. O arco (−0,817) tinha sido
aceito na planta **lenta**; o pico de wz (2,25) na planta **normal** — e
ninguém re-rodou a aceitação do arco na normal depois de recomendá-la.
Re-rodada: **−0,95 de frente, 13% forte e fora da faixa do robô.**

Causa: `rendimento_giro=0,80` foi calibrado na lenta. A derrapagem do contato
depende do transiente, e o transiente depende dos limites de aceleração do
perfil — na normal o Gazebo realiza 93% do giro pedido, não 80%. O rendimento
é propriedade da **planta**, então mudou de endereço: sai de número solto e
passa a ser escolhido pelo `sim.launch.py` junto com o perfil (lenta → 0,80,
normal → 0,93).

Re-aceitação na normal, n=3 por sentido, ao vivo para o dono
(`docs/dados/2026-08-04-aceitacao-simulador/normal-*.csv`):

```
                SIMULADOR              ROBÔ (04-08)
frente        -0,803 (3% disp)       -0,838  faixa -0,75 a -0,93   DENTRO
ré            -0,095 (0% disp)       -0,113  faixa -0,09 a -0,14   DENTRO
razão f/r          8,5x                  7,4x
pico de wz     2,17 rad/s             2,33   faixa 2,23-2,51       na borda
sobrepasso       97°                    49°                        ABERTO
```

A lição de método, registrada porque vai se repetir: **"bate" só conta na
configuração em que se vai usar.** Aceitação re-rodada a cada mudança de
planta, teto ou atrito — está escrito no `leitura.txt` e agora aqui.

O sobrepasso segue 2× (atraso de desliga, pendência estrutural conhecida) e a
dispersão segue 0–3% contra 21–37% do robô (12c). 440 testes verdes.

### O veredito do dono, ao vivo (fecha a 4ª leva)

Demonstração com GUI, as três manobras em malha aberta na frente do dono:
reto por 35 s (fechou círculo de 1,27 m, girou 494°), ré (16° em 3 m,
raio 10,9 m) e pivô (2,39 rad/s com comando de 0,6). Julgamento dele, nas
palavras dele: **"está igualzinho — se isso foi um comando de ir reto é
exatamente assim que ele faz. A ré também. O giro no lugar exatamente como
na vida real."**

O critério da decisão 004 ("o simulador só serve se errar como o robô erra")
está cumprido nas três manobras medidas, por número E por olho. Próximo
passo decidido pelo dono: malha fechada de rumo em cima deste modelo.

## 🎯 2026-08-04 (5ª leva) — A fatia 1 da 011: o robô simulado anda reto

O dono aprovou a fatia 1 ("vamos focar tudo nesse PID, em fazer ele seguir
reto de verdade, a ré também") e ela fechou na mesma sessão. Decisão escrita
antes do código: `docs/decisoes/011-malha-fechada-de-rumo-em-reta.md`.

**A arquitetura**: camada entre quem comanda e o atuador (`compensador_rumo`
no `robot_motion`), lei pura em `lei_de_reta.py` (padrão da casa). Serve
qualquer comandante. A lei explora o fato medido de que a compensação do
driver preserva a RAZÃO entre rodas: há autoridade contínua sobre curvatura
mesmo sem nenhuma sobre velocidade.

    wz = ff(sentido)·|v| + Kp·e + Ki·∫e      ff = −curvatura medida

**PI, não PID** — e o próprio teste corrigiu meu entendimento do porquê: sem
Ki o P ainda ZERA a curvatura (o robô anda reto!), mas ~6° torto da
referência — o erro constante que o P precisa manter para sustentar a
correção. O integrador existe para zerar o RUMO, não a curvatura. Isso está
travado em teste (`test_sem_integrador_o_rumo_assenta_torto`).

**Resultado na bancada** (Gazebo, planta normal, n=3 por sentido, dado em
`docs/dados/2026-08-04-fatia1-compensador/`):

```
                 SEM              COM            critério da 011
frente         -0,82 1/m       -0,0025 1/m         < 0,05     ✅ 20x
ré             -0,11           -0,0003             < 0,05     ✅
```

Raio de 1,2 m virou raio de 399 m. Giro de 0,2° em 1,2 m andados.

**Defeito de instrumento achado no caminho**: mutação por `sed` com strings
do MESMO tamanho no mesmo segundo deixa o `__pycache__` servindo bytecode
mutado para o fonte revertido — os testes "falhavam" com o código certo.
Limpar o cache resolveu; fica o aviso para as próximas mutações.

**Ressalvas** (no leitura.txt): dispersão 0% é determinismo do simulador,
não mérito; o ff aqui é exato por construção (mesma fonte da planta) — o
caso ff-errado-25% é coberto por teste de unidade; curva comandada passa
intocada por unidade, não exercitada na bancada.

13 testes novos na lei (453 verdes no total). Fatias 2-5 abertas.

### O aceite do dono fecha a fatia 1 (e as condições de validade, ditas)

Demonstração com GUI: mesmo comando que fechou o círculo de 494°, agora
pelo compensador — ida de 4,00 m com 0,0° de giro, volta DE RÉ de 3,99 m
com 0,0°, bico terminando onde começou. Veredito do dono: **"ficou
perfeito, se esse código funcionar no robô estamos voando alto."**

Às perguntas dele ("vai funcionar pra sempre? em toda aplicação?"), a
resposta registrada: NÃO incondicionalmente — as condições estão na 011
(LIO vivo, senão passa reto e grita; planta até ~25% do ff, senão re-medir;
compensação do driver ligada, senão a 011 reabre) — e vale para TUDO que
passar pela porta, que hoje é opcional (fatia 5 a torna obrigatória).
O juiz de verdade segue sendo a fatia 4, no robô.

## 📐 2026-08-04 (6ª leva) — A fatia 2 morre na medição: o gap era do instrumento

A fatia 2 (modelar o atraso de desliga da placa) abriu pelo método: medir
antes de mexer. E a medição derrubou a própria fatia.

O gap que eu reportava ("sobrepasso 99° no Gazebo contra 49° no robô")
comparava o sobrepasso A PARTIR DO PICO — que reparte diferente nos dois
lados (robô: empurra 0,5 s, freia forte ~3,3 rad/s²; simulador: empurra
0,16 s, freia suave ~1,5). Mas o número que o corte previsto consome é o
GIRO TOTAL entre "comando zerou" e "parou", fase de empurrão INCLUÍDA. O
`medir.py degrau_giro` passou a imprimi-lo, e ele diz outra coisa:

```
                giro total do corte à parada     tempo até parar
ROBÔ            102° / 114° / 124°  (~113°)      1,94–2,02 s
SIMULADOR       117° / 120° / 117°  (~118°)      1,82–1,86 s
```

**O simulador está DENTRO da faixa do robô.** Dois erros de forma se
cancelando num acerto de total — coincidência dos limites da planta, mas
medida e estável (n=3 dos dois lados, planta normal).

Consequência: **a fatia 2 sai do caminho crítico.** O corte previsto
(fatia 3) pode ser sintonizado no simulador de hoje, com uma condição de
projeto que fica registrada: o controlador do pivô deve usar SÓ o giro
total e a detecção de parada — NÃO a forma da frenagem (pico, wz no meio
do caminho), porque a forma é onde o simulador ainda mente. Se o projeto
da fatia 3 precisar da forma, a fatia 2 volta.

É a segunda vez no mesmo dia que a régua respondia outra pergunta que não
a feita (a primeira: caminho/afastamento no critério do 12b). A lição já
estava escrita em 29-07 na régua do planner; agora tem dois exemplos.

## 🔄 2026-08-04 (7ª leva) — O pivô não tem quantum: o tempo ligado é um manche

Fatia 3 aberta pelo método (medir antes de mexer), e a medição derrubou o
medo que a motivava. Dado em `docs/dados/2026-08-04-fatia3-pivo-minimo/`.

O medo: a placa entrega um wz só (~2,2 rad/s) e depois do corte o robô varre
~113°. Se isso fosse o quantum, pivô menor que meia volta seria impossível.

**Não é.** Varrendo o tempo LIGADO (`ensaio.py --liga`, novo — é a única
coisa escolhível num atuador que não modula magnitude):

```
liga [s]   0.1   0.2   0.3   0.5    0.8    1.2    2.0
giro         0°    0°    0°   3,7°  22,4°  68,9°  215,7°
pico wz    0,00  0,00  0,00  0,24   0,68   1,20    2,38
```

A razão é simples e estava na cara: **o robô ainda está acelerando quando o
corte chega.** O pico não é 2,2 — é o que deu tempo de subir. Os 113° são a
sobra *quando ele chegou ao patamar*, não um piso. O pivô é contínuo desde
~4°.

**Zona morta de TEMPO medida pela primeira vez**: abaixo de ~0,4 s ligado o
robô não sai do lugar. É o BO-3 numa dimensão que nunca tinha sido medida.

**A sobra não segue `wz²/(2·a)` com `a` constante** (o `a` implícito varia
2,2× na faixa) — a mesma não-constância que o robô mostrou, por outro
caminho. A lei da 005 erraria aqui de novo.

### ⚠️ A ressalva que decide o desenho da lei

A relação tempo→ângulo depende da **taxa de subida** do wz, e ela tem origens
diferentes nos dois lados: no simulador é um limite de **config**
(`max_acceleration: 1.5`, exato); no robô é **inércia** (1,58–2,01, 25% de
espalho). Coincidem em valor **por acaso, não por modelagem**. Só o ponto
`liga=2,0` foi conferido contra o robô.

Então a tabela acima **não pode virar tabela de consulta do controlador**. A
lei do pivô tem de funcionar sem confiar nela: **aproximação sucessiva com
corte conservador** — cortar cedo custa só tempo (27-07: "errar para baixo é
de graça"), e o resíduo se resolve com um pulso menor. A curva serve para o
primeiro chute; o fechamento é por realimentação. E isso torna a fatia 3
testável de verdade aqui: roda-se a lei com parâmetros de sobra
deliberadamente errados, como o `ff_errado_25_por_cento` fez na fatia 1.

**Para a fatia 4**: entra no protocolo do robô uma varredura de `--liga`
(0,3/0,5/0,8/1,2/2,0, n=3) — ~15 corridas curtas, e é o único jeito de ter
a curva real.

## 👁️ 2026-08-05 — O simulador ganha olhos, e eles são mais cegos do que se supunha

O dono mandou atacar percepção. Decisão 012 escrita antes do código; dado e
leitura em `docs/dados/2026-08-05-lidar-campo-de-visao/`.

**O sensor entrou**: `gpu_lidar` no topo da caixa publicando `PointCloud2`
em `/livox/lidar` — mesmo tópico do driver real, mesmo princípio do
`/Odometry`. 20 000 pontos/quadro a 10 Hz = 200 000 pontos/s, os números da
folha do Mid-360. É a primeira vez que este simulador tem sensor.

### O resultado que muda projeto

```
                    MEDIDO      PREVISTO (012)
zona cega           2,04 m         2,20 m

altura mínima para um obstáculo APARECER:
  a 0,5–1,0 m   +0,15 m       a 1,5–2,0 m   +0,03 m
  a 1,0–1,5 m   +0,09 m       a 2,0–2,5 m   vê o chão
```

**Um robô de 45 cm de largura com ~2 m de cegueira de chão em volta.** Caixa
baixa, degrau, pé de mesa: invisíveis se estiverem perto. É do **sensor**,
não do simulador — geometria dos −7° de depressão — e nenhuma sintonia de
costmap resolve. Para a fatia B sobra tratar obstáculo baixo por **memória**
(lembrar o que se viu de longe) ou por outro sensor. Não há terceira saída
com este hardware nesta altura.

### ⚠️ A régua errou primeiro, pela terceira vez na semana

A primeira medida deu zona cega 2,27 m e "sensor a 0,308 m" — com a TF
dizendo 0,270. Um ponto a −0,308 está **3,8 cm abaixo do chão**: não é
geometria, é artefato de rasância (38 pontos, 0,5% da nuvem, todos a
2,4–5,2 m). O script pegava "os pontos de z mínimo" como se fossem chão, e
os impossíveis sequestraram o mínimo — 11% de erro.

```
29-07  a régua do planner lia cúspide como curva fechadíssima
04-08  o critério do 12b usava caminho/afastamento, que não discrimina
05-08  esta
```

Por isso a conta virou **instrumento versionado**
(`tools/banco/campo_de_visao.py`, puro, sem ROS, no padrão das leis): separa
explicitamente "abaixo do chão", e tem 9 testes — um deles travando este
defeito (nuvem suja tem de dar a MESMA zona cega da limpa), verificado por
mutação.

### Dois defeitos consertados no caminho

1. **A ponte lia o tópico errado.** O `gpu_lidar` publica LaserScan em
   `<topic>` e a nuvem em `<topic>/points`. Escutando o primeiro, a ponte
   sobe, o tópico ROS aparece e **não chega nada** — sintoma com cara de
   sensor quebrado.
2. **Junta fixa preservada.** Sem isso o conversor URDF→SDF colapsa
   `livox_frame` dentro do `base_link`. Não era a causa da discrepância de
   altura (a régua era — hipótese minha, testada e derrubada), mas é o que
   deixa a pose do sensor conferível por TF, e foi assim que ela se conferiu.

**462 testes verdes.** O `test_massa_total` foi atualizado: o robô ganhou os
265 g do Mid-360, e essa é a única massa do modelo que vem de folha de
fabricante em vez de chute.

## 🔗 2026-08-05 (2ª leva) — A fatia 5 liga o compensador, e expõe o pivô que falta

O dono cortou a ida para percepção com razão de método ("eu sequer vi ele
andando com Nav2 reto, imagina desviando"). A camada de voxel do costmap foi
**revertida** — config ligada e não provada é como alguém confia nela por
engano — e a fatia 5 entrou no lugar. Dado em
`docs/dados/2026-08-05-fatia5-pilha-com-compensador/`.

### O defeito que estava escondido na pilha há uma semana

O `pilha.launch.py` **não remapeava a saída para `/cmd_vel_bruto` no
simulador**. O `navegacao.launch.py` fazia; este não. Ou seja: **toda corrida
de pilha no Gazebo até hoje passou por fora da placa fingida** — mediu um
atuador perfeito, sem patamar, sem latência, sem assimetria. É o mesmo
defeito que o `ensaio.py` tinha até o `--topico` de 04-08, e agora os
resultados de pilha de 29-07 e 01-08 herdam essa ressalva.

### A cadeia nova, e o que ela mede

```
heading_controller → /compensador_rumo/cmd_vel → compensador_rumo
                   → /cmd_vel_bruto → placa fingida → diff_drive
```

```
                mediana    max
wz PEDIDO        0,000    0,438     (heading_controller)
wz ENTREGUE      0,147    0,513     (compensador: ff + PI)
wz REALIZADO     0,040    0,509     (o robô, pela pose)
```

**A fatia 1 funciona dentro da pilha**: o compensador entrega 0,147 onde o
pedido é zero — é o feedforward cancelando o arco — e o robô realiza 0,040.

### O que NÃO funciona, apontado pelo dono na tela e confirmado no dado

```
>>> GIRO PARADO: 5 amostras de 1137  (0,4%)
    girando forte (|wz|>0,2): 104 amostras
    velocidade linear mediana enquanto gira: 0,32 m/s
    raio de curva realizado:                 0,82 m
```

**Ele não para para girar.** Toda virada que o plano pede vira arco de
0,82 m. O Smac planeja em DUBIN para raio 0,37 m; o robô entrega 0,82 m — o
caminho realizado não pode coincidir com o planejado, e o seguidor passa a
corrigir um erro que ele mesmo gera. Resultado: 1,35× de caminho e uma
navegação que parou a 3,91 m do alvo.

Isso **não é defeito do compensador nem da fatia 5**: é a **fatia 3**
faltando. Bate com 29-07, que já tinha achado "0 amostras de giro parado em
2714" no perfil pessimista — e agora, com a placa no caminho pela primeira
vez, o número reaparece medido de ponta a ponta.

**Linha de base gravada** (1137 amostras com pedido, entregue e realizado
lado a lado): os números a derrubar são **0,4% de giro parado** e **1,35× de
caminho**.

## 🔄 2026-08-05 (3ª leva) — A fatia 3 fecha, e a ré sai de cena

O pivô entrou na pilha e o robô passou a **chegar** onde antes falhava. Quatro
corridas do mesmo alvo, cada uma isolando uma mudança
(`docs/dados/2026-08-05-fatia3-pivo/`):

```
                          1-base   2-pivo   3-prior  4-livre
giro parado                 0,4%     3,3%     5,3%    12,2%
raio realizado ao virar    0,82 m   0,50 m   0,13 m   0,09 m
caminho / reta              1,35x    1,54x    1,60x    1,13x
parou a ... do alvo        3,91 m   1,78 m   0,22 m   0,17 m
pivôs iniciados/fechados     -/-      4/1      3/3      7/7
rés acionadas                 ?        4        2        0
```

**Os dois últimos passos vieram do dono olhando a tela**, e os dois estavam
certos:

1. *"ele ativa a ré muitas vezes, vezes essas que ele poderia só fazer um
   pivô"* — e o log mostrava exatamente isso: `PIVÔ → RÉ → RÉ → PIVÔ
   DESISTIU`, duas vezes em três. A ré da decisão 009 dispara por sintoma
   ("não progrediu") e **durante um pivô o robô legitimamente não progride**.
   Pior: o `PIVÔ DESISTIU — o robô não se mexeu (BO-3)` era **alarme falso**
   — a lei mandava girar e quem publicava era a ré.
2. *"deixa o pivô livre pra qualquer lado... acho que isso ajeita até esse
   arco inicial"* — desligada a ré e baixado o limiar de 40° para 15°, o
   caminho caiu de **1,60× para 1,13×**. O palpite acertou nas duas pontas.

### Um defeito de configuração que valia 5×

**A pilha nunca passava `planta`**, então caía no default `lenta` — a planta
deliberadamente pessimista de 27-07, com aceleração angular de 0,3 rad/s²
contra 1,5. O pivô comandado por 1,4 s chegava a 0,34 rad/s (0,3 × 1,4 = 0,42,
bate) contra 2,33 do robô. É a mesma classe do bypass da placa achado hoje de
manhã: **a launch não repassando o parâmetro que decide qual máquina se está
medindo.** Padrão agora é `normal`, a que passou na aceitação de 04-08.

### A premissa da decisão 009 caiu

A 009 escolheu ré-por-gatilho com estas palavras: *"o que sustenta a ré por
gatilho é o PIVÔ, e o robô 1 pivota. O robô 2 não, com os parâmetros de
hoje."* **O robô 2 pivota agora**: 7 manobras, 7 fechadas, resíduo mediano de
5°. A ré fica no código, **desligada por padrão** (`re_habilitada:=true`
religa), para o caso que só ela resolve — geometria fechada sem espaço para
girar. Não foi apagada porque esse caso não foi testado; foi apenas deixado de
acontecer.

E há um argumento independente: a ré dispara por falta de progresso, que num
robô mal-apontado é **rumo** errado, e **recuar reto não muda rumo** — medido
e registrado em 29-07 (7ª leva), "hipótese testada e derrubada".

### O que não fechou

1,13× ainda não é 1,00×, e não investiguei de onde sobra. O resíduo do pivô
encosta na tolerância (5,x de 6°) — apertar esbarra no pivô mínimo da máquina
(~4°). E é **um alvo, uma repetição**: não é n=3, e nada disso passou pelo
robô (fatia 4).

## 🎯 2026-08-05 (4ª leva) — Chegar reto e acertar o ângulo lá

Dois pedidos do dono, os dois certos, e os dois revisando decisões antigas
pela **mesma razão que derrubou a ré**: a premissa era "este robô não pivota".

> *"o planner faz ele dar esse arco pra chegar de frente pro ponto como se ele
> fosse um carro, mas ele não precisa fazer isso, ele pode ir até lá reto e aí
> dar o pivô em cima do ponto pra acertar o ângulo"*

### O planner: Smac Hybrid-A\* → Theta\* (revisa a 008)

A varredura de 29-07 descartou o Theta\* com estas palavras textuais:
*"desenha reta lateral, que só serve para robô que pivota"* e *"os dois zeros
do Theta\* nos casos de lado não são virtude — é reta lateral para um robô que
TERIA de pivotar"*. **O robô pivota agora**, então a "reta lateral" deixou de
ser defeito e virou o caminho certo.

```
mesmo alvo reto de 3,5 m:   Smac 1,13x   ->   Theta* 1,07x
alvo atrás (180°, 1,57 m):  Theta* 1,06x
```

### A chegada em duas fases (revisa a 006)

A decisão 006 tinha **cortado** o rumo de chegada, com esta razão: *"girar
depois de chegar arrasta o robô para fora do ponto (0,06 m viraram 0,27 m em
27-07)"*. Aquilo valia para um robô que só sabia **arcar** — girar significava
andar em círculo. Com o pivô, girar custa `v=0` e o robô não sai do lugar.

O ângulo vem do **`/goal_pose`**, não do fim do plano: o Theta\* devolve
orientação zerada em todos os pontos, então ler o plano daria sempre 0 rad.

```
alvo (2,0 · 1,5) rumo  -90°  ->  0,17 m   -7,5°
alvo (3,0 · 3,5) rumo    0°  ->  0,26 m   -0,7°
alvo (3,2 · 4,5) rumo  +90°  ->  0,27 m   +1,3°
alvo (1,5 · 5,5) rumo  180°  ->  0,17 m   +2,5°
alvo (3,2 · 3,0) rumo    0°  ->  0,16 m   +4,6°
```

Junto entrou uma condição no `heading_controller`: **com velocidade zero
pedida, sempre pivô**. Sem ela, erro pequeno na fase 2 cairia na lei de arco,
que aplica piso de linear e arrastaria o robô para fora do ponto — o defeito
de 27-07 de volta pela porta dos fundos.

### Um defeito de ORDEM, achado medindo

Primeira versão: 2 de 3 alvos chegavam a 0,10–0,20 m do ponto **com 84–90° de
erro de rumo**. O Nav2 declara `Goal succeeded` ao entrar no raio e **para de
replanejar**; o plano vence 2 s depois. Como a checagem de "plano velho" vinha
**antes** da de chegada, o seguidor travava em `parado (plano velho)` e nunca
alcançava a fase de apontar. A chegada passou a ser avaliada primeiro.

### ⚠️ E um aviso de instrumento que já custou três diagnósticos errados

Várias corridas reprovaram por falha do **teste**, não do robô: o script
publicava em `/goal_pose` antes de os assinantes existirem. Esta máquina tem
descoberta de nós instável (o Gazebo loga `Exception sending a multicast
message: Network is unreachable`), então nó efêmero que publica e sai perde
mensagem. Com **um** assinante o robô navega e o ângulo não chega — que era
exatamente o sintoma. O script passou a esperar os **dois**.

**Aberto**: o A/B do Smac na manobra "atrás" não rodou; é n=1 por alvo; e nada
disso passou pelo robô (fatia 4).

## 🛡️ 2026-08-05 (5ª leva) — O robô ganha um freio de mão

Pedido do dono depois de ver o robô bater: montar o `twist_mux` **antes** do
`collision_monitor`. O levantamento da 010 (commitado hoje) já apontava a mesma
ordem, e por uma razão que vale escrever: **a pilha do robô 2 não tinha árbitro
nenhum**. O `heading_controller` publicava direto no atuador, e não existia
como uma pessoa tomar o controle de um robô indo para a parede — sendo que
"humano tem prioridade sobre goal" é um dos poucos princípios que o `CLAUDE.md`
diz valer nos **dois** robôs.

### A cadeia agora

```
heading_controller ──/auto_vel──┐
teclado (robot-key) ─/key_vel───┤ twist_mux   humano 90/50 > autonomia 10
web ────────────────/web_vel────┘     │
                                      ▼ /compensador_rumo/cmd_vel
                               compensador_rumo  (cancela o arco)
                                      ▼
                        /cmd_vel_bruto (sim) ou o atuador (robô)
```

O compensador ficou **depois** do mux de propósito: o arco do corpo é do robô,
não da fonte. Humano que pede "reto" merece reto pelo mesmo motivo que o Nav2.

### Provado nas três situações

```
autonomia sozinha     auto pede +0,483  ->  sai +0,483   passa
humano assume (ré)    auto pede +0,162  ->  sai −0,250   HUMANO VENCE
humano solta (3 s)                      ->  sai +0,493   autonomia retoma
```

### Duas coisas que o robô 1 não podia nos dar

1. **`use_stamped: true`.** O robô 1 usa `false` porque a cadeia dele é Twist
   cru. Copiar aquele valor faria o DDS rejeitar por *type hash*: o mux
   publicaria e ninguém consumiria — falha silenciosa, a classe de defeito que
   mais custou tempo aqui (BO-3). Travado em teste.
2. **Teleop próprio** (`teleop_teclado`). O `teleop_twist_keyboard` de fábrica
   não publica stamped no Jazzy, e ele tem teclas de passo de velocidade que
   **seriam mentira neste robô**: a compensação entrega um patamar, e comandar
   0,10 ou 0,50 dá a mesma coisa na placa. O nosso é **homem-morto**: sem tecla
   nova por 0,4 s o comando cai a zero sozinho — terminal não avisa quando a
   tecla é solta, e um teleop que repete o último comando para sempre é um robô
   que continua andando depois de a pessoa largar o teclado, o oposto de um
   freio de mão.

### Uma diferença deliberada para o robô 1

Lá existe a faixa `unstuck_vel` (prio 30) que **fura** o reflexo de colisão
para dar ré. Aqui ela **não existe ainda**: (a) não há reflexo para furar; e
(b) a recuperação deste robô é **pivô**, não ré — a premissa "girar não vence o
atrito" é do skid-steer do robô 1 e caiu em 05-08. Quando a recuperação por
sintoma entrar, ela ganha a faixa entre o humano e a autonomia.

**492 testes verdes** (eram 488), 4 deles travando o mux: humano acima da
autonomia, `use_stamped`, todo tópico com timeout, e os nomes da launch batendo
com os do YAML.

## 🧱 2026-08-05 (6ª leva) — As batidas: quatro causas, e a régua primeiro

O dono pediu para atacar as batidas antes do `collision_monitor`. Antes de
mexer, a **régua** (`tools/banco/folga.py`): até hoje a única evidência de
colisão era o olho dele no RViz, e olho não compara duas sintonias. Ela mede
contra o **mapa**, não contra o sensor — o sensor tem 2 m de zona cega e diria
"livre" justamente onde o robô raspa. Dado em
`docs/dados/2026-08-05-batidas-nav2/`.

```
                                    invasões  raspões  folga mín
1. base (inflação 0,30)                2509     3831     0,308
2. raio 0,32 + inflação 0,35             34     9636     0,296
3. + w_traversal_cost 5,0                59      259     0,291
4. + lookahead 0,37 (era 0,555)           0      285     0,331
5. + inflação 0,50 + cost_scaling 3,0     0        0     0,449
```

**0,45 é o máximo teórico** — a folga de um robô centrado num vão de 0,90 m. O
pior ponto da última corrida caiu em (4,07 · 2,49), e o centro da porta é 2,50.
Veredito do dono: *"lindo, passou perfeitamente no meio"*.

### As causas, na ordem em que apareceram

**(a) Inflação menor que o raio inscrito** (0,30 contra 0,363). O Nav2 acusava
como ERRO desde 01-08 e ninguém tinha medido o custo: sobrava uma faixa de 6 cm
onde o corpo encosta e o costmap diz "livre".

⚠️ **Subir só a inflação para 0,40 PIOROU** (6299 invasões): trouxe de volta o
`Start occupied` de 29-07. O robô entrava na porta, o replanejamento achava que
a própria posição dele era obstáculo, o plano sumia, o seguidor parava por
"plano velho" e o pivô girava no lugar. Foi o que o dono viu e perguntou se era
o collision monitor — **não era; não existe collision monitor.** Era o planner
recusando o próprio robô.

**(b) O `robot_radius` estava 15% maior que o robô.** 0,36 configurado contra
**0,314 real** — a trena de 29-07 deu caixa 0,433 × 0,455, e as rodas (borda a
0,158) e a boba (ponta a 0,215) ficam dentro. Numa porta de 0,90 m isso é a
diferença entre 9 e 13 cm de folga por lado. Corrigidos juntos, as invasões
caíram de 2509 para 34. **O teste de coerência pegou a bancada do planner com o
valor velho** — é para isso que ele existe (a bitola divergiu assim em 29-07).

**(c) O caminho passava colado na quina.** `w_traversal_cost` 2,0 era o valor da
bancada, nunca julgado em execução. Para 5,0: raspões de 9636 para 259.

**(d) O seguidor cortava a quina.** `lookahead_fator` 1,5 dava mira de 0,555 m —
mais da **metade** do vão da porta. A cenoura caía depois da porta e o robô
cortava por dentro. O 1,5 vinha de um seguidor que **não pivotava** e precisava
de mira longa para não oscilar; este pivota e tem o compensador cancelando o
arco. Com 1,0 (0,37 m) as invasões zeraram.

**(e) E ele ainda passava na quina, sem bater.** Dentro do vão o costmap ficava
**plano** — o `cost_scaling_factor` padrão (10) faz o custo despencar logo após
o inscrito, e planner que não vê diferença entre o meio e a quina escolhe o mais
curto. Com inflação 0,50 e `cost_scaling_factor` 3,0 as inflações das duas
ombreiras se encontram no meio e criam um **mínimo no centro**. A inflação de
0,50 só é possível **porque** o raio foi corrigido: com 0,36 ela reproduziria o
`Start occupied`.

### Aberto

**Fluidez** — palavra do dono: *"tá parandinho demais"*. Ele para e pivota com
15° de erro, e isso é frequente. Subir o limiar devolve arco; a saída provável é
pivô só para erro grande e o compensador segurando a reta no resto. É sintonia,
e sintonia sem medida vira gosto — precisa de régua própria.

E segue tudo com o **mapa estático**: obstáculo que não está no mapa continua
invisível. Disso trata o `collision_monitor`, o próximo da fila.

## 🛡️ 2026-08-05 (7ª leva) — O reflexo de colisão entra, e o humano continua furando ele

Segundo item do levantamento da 010 (o `twist_mux` foi o primeiro). Portado do
robô 1 com **todos** os números re-derivados. Dado em
`docs/dados/2026-08-05-reflexo-colisao/`.

```
heading_controller ──/auto_vel_raw──▶ collision_monitor ──/auto_vel──▶
    twist_mux  ◀── /key_vel (humano, prio 90)
         │
         ▼  compensador_rumo ──▶ atuador
```

### Provado em duas pontas

**1. Ele para diante de obstáculo que o mapa não tem.** Caixa de 0,6 m de
altura em (3,2 · 5,0), presente no **mundo** e ausente do **mapa** (que sai do
`gera_pista.py` e não a conhece). Comando de frente publicado direto no
`auto_vel_raw` por 30 s:

```
face da caixa            x = 2,95
primeiro corte           x = 2,40
robô parou em            x = 2,46      distância centro→face  0,49 m
10215 de 11991 amostras zeradas com a autonomia insistindo
```

Os 0,49 m são exatamente o alcance do polígono — e ele não é gosto:

```
coasting (a placa empurra 0,5 s após o corte)  0,298 × 0,5      = 0,149 m
frenagem (a_lin medido 0,373)                  0,298²/(2·0,373) = 0,119 m
+ meia caixa                                   0,433/2          = 0,216 m
                                                        frente    0,485 m
```

**2. O humano fura o reflexo.**

```
autonomia insiste em ir para frente (5 s)  ->  andou +0,000 m
humano manda ré pelo /key_vel      (6 s)  ->  andou −0,829 m
```

### Duas diferenças de fundo para o robô 1

1. **Um polígono só, e a ação é PARAR.** O robô 1 tem um `PolygonSlow` com
   `action_type: limit` (linear_limit 0,10). Aqui é **impossível**: a
   compensação entrega um patamar de ~0,30 m/s e não existe velocidade entre 0
   e isso. **Desacelerar não é uma ação que este atuador saiba executar.**
2. **`stop` estático e não o `approach` do robô 1.** O `approach` projeta o
   footprint pela velocidade **comandada**, e aqui o comando não diz a
   velocidade: o seguidor pede 0,50 e o robô anda 0,30. Projetaria 1,7× longe
   demais. Como a velocidade real é sempre a mesma, a caixa estática é mais
   honesta **e** mais interpretável depois.

### ⚠️ E o que ele não vê, que é geometria e não sintonia

O polígono vive a menos de 0,5 m do robô, e o Mid-360 não vê o chão dentro de
~2,04 m. Obstáculo a 0,5 m só entra na nuvem se for **mais alto que ~0,21 m**.
Ele protege contra parede, pessoa em pé e móvel alto; é **cego para caixa
baixa, degrau e pé de mesa** — boa parte do que se quer pegar. A caixa desta
prova tem 0,6 m de altura **de propósito**.

Medir a altura de montagem do Mid-360 com trena segue sendo o item barato de
maior retorno: a zona cega escala ~8,1× com ela.

**503 testes verdes**, 5 deles travando o reflexo.

**Falta do levantamento**: detecção por sintoma com **pivô** como recuperação
primária, medida de vão livre contra a nuvem, e o `motion_guard` reescrito.

## 🤖 2026-08-05 (8ª leva) — A ida ao robô: o compensador passa, e o pivô não é dirigível

Primeira sessão no robô real desde 04-08. Conduzida por ssh no NUC
(`10.244.3.205`); o dono só executou o físico. **21 corridas.** Dados crus e
registro completo em `docs/dados/2026-08-05-bancada-robo/` (com `ambiente.txt`).

O NUC estava 6 commits atrás e **nunca tinha compilado o `robot_motion`** — sem
o build desta sessão o `compensador_rumo` não existiria na máquina.

### Teste A — o compensador de rumo funciona, e as duas médias passam

```
                    sem compensador          com compensador       redução
FRENTE  n=3        −0,9116 (raio 1,10 m)   +0,0417 (raio 24 m)      95,4%
RÉ      n=3        −0,0968 (raio 10,3 m)   −0,0466 (raio 21 m)      52%
                                        critério (011): |curv| < 0,05
```

A linha de base reproduziu 04-08 (−0,817 frente, −0,098 ré) com a razão
frente/ré em 9,4× contra 8,3× — a assinatura da boba está lá, igual.

**Três ressalvas que o número sozinho esconde:**

1. **3 das 6 corridas compensadas estouram o critério individualmente.** Passa
   na média de três, não em toda corrida.
2. **Os dois sentidos falham por motivos opostos, e não têm o mesmo conserto.**
   De frente ele **oscila** — o dono viu a olho: *"de frente ele faz um pequeno
   S para tentar compensar o erro"*. Por isso a curvatura varia 0,019 a 0,062:
   o valor depende de onde a corrida cortou na **fase** do S, não é ruído.
   Suspeito com número: `kp=1,0` e `ki=0,5` contra os ~0,52 s de atraso de
   desliga da placa, com malha a 10 Hz — integrador contra tempo morto é o que
   fabrica ciclo-limite. De ré ele fica **sempre aquém**, nunca além (o dono:
   *"na ré ele não faz S, ele pende pro mesmo lado, mas claramente menos"*).
3. **O espalho absoluto não mudou** (0,035 → 0,044 1/m). O compensador tirou o
   **viés sistemático** e não tocou na variabilidade da máquina. Nenhum ajuste
   de ganho aperta isso, porque é da planta.

🔴 **Conserto que EU propus e que os dados derrubaram na mesma sessão**: previ
resíduo negativo (o ff supõe −0,817, a planta de hoje é −0,91) e propus trocar
`curv_frente`. Saiu resíduo **positivo** — ff mais forte empurra para o lado
que já está sobrando. Mexer ali **piora**.

### Teste B — o pivô em malha aberta não pode funcionar neste robô

```
liga [s]   n    giro médio    faixa            espalho   pico wz
  0,10     1       2,7°          —                —       0,11
  0,15     3      27,8°     16,6 – 33,4°        60%      0,51 – 0,87
  0,20     3      32,5°     30,3 – 35,8°        17%      0,83 – 0,92
  0,30     1      48,0°          —                —       1,33
simulador            0,0° em TODOS estes tempos
```

**A "zona morta de tempo" de 04-08 não existe no robô.** O simulador previa que
abaixo de ~0,4 s ligado ele não sai do lugar; 0,3 s dão 48° (confirmado a olho:
*"girou sim, uns 45 graus"*). A varredura do plano começa **acima** de todo o
fenômeno — a resposta está abaixo de 0,3 s.

🔴 **O achado principal: o pivô não é repetível com comando idêntico.**

```
            tempo REAL ligado    pico wz    giro
0,15-a          0,14 s            0,51     16,6°
0,15-b          0,16 s            0,87     33,4°
0,15-c          0,14 s            0,83     33,4°   <- mesmo tempo da (a), o dobro
```

⚠️ **Hipótese minha, testada e derrubada na mesma sessão**: com `a` e `b` atribuí
o espalho aos 20 ms de diferença no tempo ligado ("0,84°/ms"). A corrida `c`
matou isso — mesmo tempo, o dobro do giro. Dois pontos desenham qualquer reta.

A causa está na **planta** e aparece no pico de wz: com o mesmo comando a placa
levou o robô a 0,51 rad/s numa corrida e a 0,83 na outra. É **bimodal perto do
limiar de partida** (60% de espalho em 0,15 s; 17% em 0,20 s, já passado o
limiar). Encosta no `a_dec` efetivo espalhando 50% em 04-08.

**E o que fecha o assunto: as faixas se sobrepõem.** `liga 0,15` dá 16,6–33,4°;
`liga 0,20` dá 30,3–35,8°. **Comandar 0,15 s ou 0,20 s pode dar o mesmo ângulo.**
Não é "o pivô é impreciso" — é que a grandeza que o controlador escolhe **não
determina** a que ele quer. Pivô tem de ser malha fechada no yaw.

⚠️ **O pivô mínimo medível não é o pivô mínimo útil.** Em `liga 0,1` o yaw dá um
degrau limpo de 2,7° e fica lá por 4 s (piso de ruído do LIO: ±0,3°). Mas o dono
disse *"ele não se mexeu"* — e está certo: 2,7° numa caixa de 45 cm é 1 cm na
quina. As duas frases são verdadeiras e nenhuma corrige a outra.

⚠️ **Defeito de instrumento achado e consertado durante a sessão**: a régua do
pivô procurava a parada a partir do **corte** do comando; com pulso curto o
comando acaba **antes** de o robô sair (latência de liga ~0,27 s), então ela
achava "parado" no próprio corte e jogava o giro fora — leu 0,4° onde havia
35,8°. O sintoma que denunciou foi a **incoerência interna**: 0,4° de giro com
pico de 0,92 rad/s. Consertada, ela segue reproduzindo a tabela do simulador
exatamente. (Vive fora do repo; se o teste B virar rotina, entra no
`tools/banco/` **com teste**.)

### Medida nova com trena: o Mid-360 está a 42 cm, não a 27

Fecha o item que o `ESTADO` listava como "o mais barato e de maior retorno".

```
                          raio cego    altura mínima visível a 0,5 m
suposto (27 cm)            2,19 m               21 cm
MEDIDO  (42 cm)            3,40 m               36 cm
```

**O simulador está 55% otimista em zona cega.** E a caixa do teste D precisa ter
**50 cm**, não os 40 do plano.

### Testes C e D não rodaram — dois bloqueios, os dois diagnosticados

**C (freio de mão) — ABI.** O `ros-jazzy-twist-mux` foi instalado e não sobe:
`undefined symbol: diagnostic_updater::Updater::Updater(...)`. A máquina tem
`diagnostic-updater` 4.2.6 (out/2025) e o `twist_mux` é 4.5.0 (jun/2026).
🛑 **O upgrade NÃO foi feito de propósito**: `libcontroller_manager.so` declara
essa lib e o processo vivo a tem mapeada. Subir a 4.2.7 não afeta o que já roda,
mas **na próxima subida a base pode não subir**. Conserto recomendado: compilar
o `twist_mux` **do fonte no nosso workspace**, em commit fixado — o padrão que o
`setup_livox.sh` já usa. Nenhuma lib do sistema tocada.

**D (reflexo) — o robô real não tem modelo geométrico.** O `tracao.launch.py`
carrega `hoverboard_driver/.../diffbot.urdf.xacro`, que é o **exemplo de
demonstração do `ros2_control`**, nunca substituído:

```
                 o que o ROBÔ carrega        real (trena 29-07)
caixa            0,10 × 0,10 × 0,05 m      0,433 × 0,455 × 0,145
raio da roda     0,015 m                    0,080 m
bitola           0,10 m                     0,270 m
bobas            duas                       uma
Livox            não existe                 existe, a 42 cm
```

⚠️ **Separar as duas consequências**: os números de hoje **não** são afetados (a
cinemática vem do `hoverboard_controllers.yaml`, e a bancada mede a pose do
`/Odometry` direto — nada passa pelo TF). Mas **tudo que usa geometria no robô
real está errado**: polígonos do `collision_monitor`, footprint do Nav2,
montagem de sensor. É por isso que o reflexo nunca teve chance ali.

**A descrição correta já existe no repo** — `robo2.urdf.xacro`, com a caixa
medida, a boba, a bitola e o `livox_frame`. Ela só nunca foi usada pelo robô,
porque nasceu como descrição do simulador. Conserto: o `tracao.launch.py` passa
a carregá-la, com a seção `ros2_control` apontando para o hardware real — que é
o que a decisão 004 já prescreve ("só a camada de hardware muda").

⚠️ **Nota de instrumento**: o `tf2_echo` desta sessão **não é confiável** (negou
até o `base_link`, que existe). O diagnóstico acima não depende dele: está no
arquivo, e `grep -c livox diffbot_description.urdf.xacro` = 0.

### Duas armadilhas de bancada, para não repetir

- **`pgrep -c -f "[f]astlio"` mentiu**, acusando 2 pilhas. O truque do colchete
  protege contra o `pgrep`, **não contra o resto da linha de comando do ssh** —
  a palavra aparecia num `printf` do mesmo comando e o bash casou consigo mesmo.
  Conferir com `pgrep -a`, que mostra **quem** casou.
- **`Received a non-finite error value` na subida não é o defeito de 24-07**:
  parou em 58 linhas. O do registro (quadro de 18 vs 26 bytes) inunda o log para
  sempre e deixa as rodas paradas.

### Piso e bateria, de novo, NÃO INFORMADOS

Em 04-08 era uma pena. **Hoje é pior**: a bateria virou suspeita nomeada — é um
dos três candidatos para a corrida `0.15-a` ter saído fraca (pico 0,51 contra
0,83 com o mesmo comando). E a linha de base repetida no fim da sessão deu
**−0,8652**, fora da faixa da manhã, sugerindo que a planta enfraqueceu ~5% ao
longo da tarde. Com `n=1` isso não estabelece deriva — mas se for real, vale
0,046 1/m, **do mesmo tamanho do resíduo inteiro depois de compensar**.

## 🔧 2026-08-05 (9ª leva) — O simulador ganha as duas pontas da placa, e o pivô ganha mecanismo

Sessão de dev, sem robô. Alvo: a **terceira pendência** do `ESTADO` — *"o
simulador desacelera 2× mais rápido por falta do atraso de desliga da placa
(~0,5 s) — entrada estrutural, não é parametrização"*. Juiz: a varredura de
pivô medida no robô nesta mesma manhã.

Dados, leitura e a régua em `docs/dados/2026-08-05-aceitacao-atraso-desliga/`.

### Três mudanças, cada uma obrigada por um dado

1. **Atraso de desliga** no `placa_simulada` (0,52 s, de 04-08 n=3): depois do
   comando zerar a placa continua empurrando.
2. **A latência de liga deixou de DESCARTAR o comando.** Ela era um
   `return 0,0` enquanto corria — uma janela em que o comando não existia.
   Consequência que sobreviveu meses porque nada no projeto comandava pulso
   curto: **todo pulso menor que 0,27 s produzia exatamente nada**. O robô gira
   32° com pulso de 0,20 s. Virou **fila de atraso**: a placa entrega, a roda
   responde depois.
3. **`update_rate` do simulador 50 → 10 Hz, igual ao robô.** Não modela
   fenômeno novo: **remove** uma divergência que estava documentada como
   deliberada (*"no simulador não custa nada"* — custa).

### 🔴 A taxa explicou o pivô, e corrige a conclusão da 8ª leva

A 10 Hz o atuador só é atualizado a cada 100 ms: o tempo de comando não é
contínuo, é **contado em ciclos**. Com 16,6° como o giro de um ciclo:

```
liga 0,20 = 2 ciclos -> 33,2° previsto, robô deu 30,3 a 35,8
liga 0,30 = 3 ciclos -> 49,8° previsto, robô deu 48,0
liga 0,15 = 1,5      -> 16,6 OU 33,2,   robô deu 16,6 e 33,4
```

E o número que fecha: **33,4 / 16,6 = 2,012**.

**A entrada da 8ª leva (e o `ambiente.txt` da bancada) atribuem a
não-repetibilidade do pivô à planta — "atrito de partida, queda de tensão da
bateria, fase de comutação". Está errado.** A causa é a **fase do comando
contra o laço de 10 Hz**, e a diferença de pico (0,51 contra 0,83) é
*consequência* de ter recebido metade dos ciclos.

Confirmado **por dentro do simulador**, com a retenção desligada para isolar a
taxa:

```
liga 0,10 -> 1 ciclo       -> 0,8°   (3 de 3 iguais)
liga 0,20 -> 2 ciclos      -> 3,0°   (3 de 3 iguais)
liga 0,30 -> 3 ciclos      -> 6,8°   (3 de 3 iguais)
liga 0,15 -> 1 OU 2 ciclos -> 0,8 · 3,0 · 0,0
```

Os múltiplos de 100 ms saem **perfeitamente repetíveis**; só o 0,15 espalha, e
espalha exatamente entre os valores de 1 e de 2 ciclos.

✅ **De quebra, o item 12c**: o `ESTADO` registrava *"o simulador é determinista
demais... faz qualquer controlador parecer mais repetível do que vai ser"*. A
bimodalidade veio junto com a taxa, sem ninguém pedir.

### As duas aceitações

**O arco (não podia regredir), n=3 por sentido — PASSOU e melhorou:**

```
              SIM 50 Hz    SIM 10 Hz    ROBÔ 04-08   ROBÔ 05-08
frente        −0,817       −0,8199      −0,838       −0,9116
ré            −0,109       −0,0938      −0,113       −0,0968
razão           7,5×         8,74×        7,4×         9,4×
```

O medo declarado ao baixar a taxa era o **BO-4** (*"o contato da boba precisa de
passo fino"*). **Não se concretizou.**

**O pivô, n=3 por ponto — NÃO passou:**

```
liga       SIM média (faixa)      ROBÔ
0,10 s     19,0 (19,0–19,1)        2,7   (n=1)
0,15 s     21,8 (19,3–26,6)       27,8   (16,6–33,4)
0,20 s     26,7 (23,2–30,4)       32,5   (30,3–35,8)
0,30 s     30,2 (27,8–34,1)       48,0   (n=1)
```

O defeito que sobra tem assinatura clara: **a curva do simulador é chata
demais** (19° com 1 ciclo, 30° com 3 — fator 1,6), enquanto o robô é **linear
nos ciclos** (fator 3,0). A retenção ainda soma um bloco quase fixo (~0,26 s
equivalentes, mesmo com o decaimento linear).

### Por que paramos aqui

**Os dois pontos em que o simulador mais discorda são exatamente os dois em que
o robô tem n=1.** E o `0,10` é onde a hipótese da quantização **já prevê**
bimodalidade — 2,7° é compatível com aquela corrida ter pego **zero** ciclos.
Continuar reformando o modelo seria ajustar contra duas amostras únicas: a forma
de erro que este projeto já pagou três vezes (a bitola em 29-07, a régua do
planner em 29-07, e a hipótese dos "20 ms" na bancada desta manhã).

➡️ **Prioridade da próxima ida ao robô**: repetir `liga 0,10` e `liga 0,30` com
n=3. O `0,10` é uma **previsão falsificável** — se a quantização estiver certa,
tem de sair bimodal (ora ~0°, ora ~16°).

### Duas armadilhas de processo, minhas, nesta sessão

- **`ros2 param set` não chega no nó.** O `placa_simulada` copia os parâmetros
  para `self.par` no construtor e não tem callback — o `param get` respondia
  `0.0` e o nó seguia com `0,52`. Uma varredura inteira foi descartada.
- **Cinco `parameter_bridge` órfãos**, um de cada simulador da sessão,
  sobreviveram aos `kill` (que miravam só `gz sim`, `sim.launch` e
  `placa_simulada`). Como o `gz transport` descobre por rede, cada ponte
  reencontrava o Gazebo novo e republicava `/Odometry`: **5 publicadores e
  190 Hz** onde o normal é 1 e 46. Todas as varreduras intermediárias foram
  descartadas. É a doença de 31-07, na máquina de dev.
  **Conferência de saúde antes de medir passa a ser obrigatória**: 1 publicador
  em `/Odometry`, taxa ~46 Hz, spawner sem falha.

**513 testes verdes** (eram 503), dois dos novos verificados por mutação: com o
descarte de volta só o teste do pulso curto falha; com a retenção segurando o
valor cheio só o teste do decaimento falha.

## 🔌 2026-08-05 (10ª leva) — O `twist_mux` entra pelo fonte, e o `apt upgrade` fica provado perigoso

Primeiro item da fila de dev: destravar o **teste C** (freio de mão), que ficou
bloqueado na bancada porque o `ros-jazzy-twist-mux` instala e **não sobe**.

### O diagnóstico da bancada estava certo no mecanismo e errado no culpado

Na bancada eu li o erro (`undefined symbol: diagnostic_updater::Updater::...`)
como "ABI: a máquina tem `diagnostic_updater` 4.2.6 e o `twist_mux` quer 4.2.7".
Certo. Mas **o dev tem o MESMO par de versões e o `twist_mux` sobe normalmente**.

A diferença não é a versão, é a **data de compilação** do pacote:

```
                        DEV                      NUC
diagnostic-updater   4.2.6-...20260412        4.2.6-...20251007
twist-mux            4.5.0-...20260412        4.5.0-...20260615
```

O `twist_mux` de junho foi compilado contra uma `diagnostic_updater` mais nova
que a de outubro. Mesmo número de versão, ABI diferente.

### 🛑 E a pergunta que decidia tudo, agora respondida com número

*"Subir só a `diagnostic_updater` para 4.2.7 resolveria?"* — eu tinha abortado
isso no robô por medo de quebrar o `controller_manager`. Baixei o `.deb` da
4.2.7 e li os símbolos **sem instalar**:

```
diagnostic_updater 4.2.6   exporta  ...NodeTopicsInterfaceEEd     (só)
diagnostic_updater 4.2.7   exporta  ...NodeTopicsInterfaceEEdh    (só)
```

**O símbolo antigo DESAPARECE na 4.2.7** — o construtor ganhou um parâmetro e o
nome mangled mudou. É substituição, não adição. Então subir essa lib no NUC
**quebraria todo consumidor compilado contra a 4.2.6**, inclusive o
`controller_manager`, que a base usa e que estava com a lib mapeada no processo
vivo. **O medo estava certo, e agora está medido em vez de suposto.**

➡️ Fica registrado: aquele caminho só funciona como **upgrade coerente da pilha
inteira**, com o `controller_manager` reconstruído junto e a base conferida
depois. Sessão própria, nunca no meio de uma bancada.

### O conserto: `setup_twist_mux.sh`

Mesmo padrão e mesma razão do `setup_livox.sh` — upstream de terceiro entra por
**clone em commit fixado**, não vendorizado. Compilado no NUC, o `twist_mux`
liga contra os headers que a máquina **tem** e passa a pedir `...d`, que existe.
Nenhuma lib do sistema é tocada.

Verificado por inspeção antes de tentar: `twist_mux_diagnostics.cpp` constrói o
Updater com `make_shared<Updater>(mux)` — um nó só, os demais parâmetros vêm por
default do header, então compila contra as duas versões.

### A arbitragem virou prova de bancada (`tools/banco/prova_mux.py`)

Dois dos três itens do teste C **não precisam de robô nem de dedo no teclado** —
são afirmações sobre arbitragem de tópico. Provados aqui:

```
1. só a autonomia                  regime=[0.1]   ✓ a autonomia passa
2. autonomia + humano juntos       regime=[0.9]   ✓ o humano VENCE
3. só a autonomia de novo          regime=[0.1]   ✓ o comando VOLTA
4. ninguém publica                 0 msgs         ✓ comando velho não é repetido
```

Isso também protege contra o modo de falha mais chato do mux: **ele não reclama
quando ninguém escuta**. Se o tipo divergir (`Twist` cru contra o `TwistStamped`
de toda a cadeia deste robô), o DDS rejeita por type hash, o mux publica no
vazio e o log fica limpo — um freio de mão que não freia, sem uma linha de erro.

⚠️ **A primeira versão do script reprovou uma arbitragem CORRETA**: ela juntava a
fase inteira num conjunto e via `[0.1, 0.9]`, sem distinguir o vazamento dos
primeiros instantes da transição (o mux age na chegada da mensagem) do regime.
Passou a separar `tudo` de `regime`, e a julgar pelo regime.

**Falta do teste C só o item 1**, que precisa de máquina: soltar o teclado e o
robô parar sozinho em 0,4 s. 513 testes verdes (sem mudança — o `prova_mux.py`
é ferramenta de bancada como o `ensaio.py`, não teste de suíte).

## 🧱 2026-08-05 (11ª leva) — O robô real ganha um corpo, e o Livox entra no lugar medido

Segundo item da fila de dev: destravar o **teste D** (reflexo de colisão), que
parou na bancada porque **não existe `base_link → livox_frame` no robô**.

### A mudança foi muito menor do que o bloqueio sugeria

O levantamento mostrou que a arquitetura *"uma descrição, dois hardwares"* já
estava construída: o `robo2.urdf.xacro` tem os **dois** blocos `ros2_control`
(`GazeboSimSystem` e `HoverboardSystem` com o plugin real), chaveados por
`<xacro:arg name="sim">`, e o include do Gazebo está protegido por `<xacro:if>`.
Ela só nunca foi ligada ao robô: o `tracao.launch.py` carregava
`hoverboard_driver/urdf/diffbot.urdf.xacro`, o **exemplo de demonstração do
`ros2_control`**.

Antes de trocar, renderizei os dois xacro e comparei o bloco de hardware:

```
plugin          hoverboard_driver/hoverboard_driver   ==  idêntico
juntas          left_wheel_joint, right_wheel_joint   ==  idênticas
device          /dev/ttyUSB0                          ==  idêntico
wheel_radius    0.080                                 ==  idêntico
feedback_sign   +1,0 / −1,0                           ==  idênticos
deadband        true / 100.0                          ==  idênticos
```

**A troca não mexe no atuador.** O que muda é o corpo: `base_link` ganha a caixa
medida, uma boba em vez de duas, e o **`livox_frame` passa a existir**.

Verificado subindo o `tracao.launch.py` aqui, sem placa: `Loaded hardware
'HoverboardSystem'`, o `robot_state_publisher` de pé, e a TF
`base_link → livox_frame` aparecendo. (O `ros2_control_node` morre depois, na
serial — esperado sem robô.)

E há um detalhe que a troca conserta sozinho: o `robo2.urdf.xacro` traz o
comentário *"⚠️ ESTE é o bloco que o robô lê"*, que **era falso** — e foi
justamente essa confusão que fez alguém editar o arquivo errado em 31-07,
segundo o próprio comentário.

### A altura do Mid-360: 27 cm supostos → 42 cm medidos

```
                    raio cego     a 0,5 m só vê acima de
suposto (27 cm)      2,19 m              21 cm
MEDIDO  (42 cm)      3,40 m              36 cm
```

O simulador estava **55% otimista em zona cega** — enxergava obstáculo baixo que
o robô não enxerga. Consequência de campo: a caixa do teste D precisa ter
**50 cm**, não os 40 do plano (a 0,5 m sobrariam 4 cm de margem).

⚠️ O valor entra **direto**, sem somar `altura_solo` nem `caixa_z`: a medida é do
chão, e `base_link` está no nível do chão (a junta da roda fica a `roda_raio`
acima dele). Somar era o que a versão anterior fazia — e é onde o erro se
escondia.

### Quatro testes novos, porque nada travava esse número

`test_urdf_robo2.py` cobria caixa, massa, rodas e boba, e **nada** cobria o
sensor. É a lição de 29-07 ("a bancada não tinha teste nenhum — foi assim que
sobreviveu errada"). Entraram: o `livox_frame` existir na descrição **real**, a
altura ser a medida e centrada, a **zona cega que ela implica** (traduz a altura
na grandeza que a operação sente) e o sensor ser o ponto mais alto do robô.
Verificados por mutação: voltando aos 27 cm, dois falham.

### 🔴 Achado sem conserto: o `collision_monitor.yaml` descreve o robô errado

O comentário que justifica `max_height: 0.50` diz *"acima de 0,50 o robô passa
por baixo — ele tem 0,30 m de alto"*. **O robô não tem 0,30 m de alto**: a caixa
termina a 0,230 m e o Mid-360 está a 0,42 m. O "0,30" é do modelo antigo da
decisão 004 (caixa 0,50 × 0,50 × 0,30).

Não mexi: `max_height` é parâmetro de **segurança** e merece decisão própria, não
um efeito colateral desta fatia. Fica travado em teste
(`test_o_livox_e_o_ponto_mais_ALTO_do_robo`) para não passar batido de novo.

**517 testes verdes** (eram 513). ⚠️ O que **só o robô** pode confirmar:
`sessao.py --checar` mostrando `wheel_separation = 0.2700` vivo depois da troca
de descrição. É o primeiro passo da próxima ida.

## 🌀 2026-08-05 (12ª leva) — O `ki` não é o culpado, e o simulador não pode arbitrar

Terceiro item da fila: atacar o **S** que o dono viu no robô (*"de frente ele faz
um pequeno S para tentar compensar o erro"*). **Resultado negativo**, e está
guardado por isso — dados em `docs/dados/2026-08-05-ki-no-simulador/`.

### A régua que faltava (`tools/banco/mede_o_s.py`)

Curvatura média **não distingue pender de oscilar**: um robô que serpenteia ±10°
e volta dá curvatura quase nula, igual a um que pende pouco. Era por isso que o
número de 05-08 (`+0,0417`) não contradizia o olho do dono — ele simplesmente
não falava sobre aquilo. A régua nova conta **inversões do sentido de giro**:

```
sem compensador   amp 68,0°      invs 0   deriva −68°     <- PENDE
com compensador   amp 9,4–18,5°  invs 2   T 2,2–2,4 s     <- o S
```

### A varredura, e o que ela derrubou

```
ki      1,00 → 0,50 → 0,25 → 0,10 → 0,00     invs: 1, 1, 1, 1, 1
kp      1,00 → 0,40                          invs: 1, 1   (e PIOROU)
```

**Nenhum ganho, em nenhum valor, mudou o número de inversões.** A hipótese era o
integrador brigando com os 0,52 s de tempo morto da placa — se fosse isso,
zerar o `ki` teria de mudar alguma coisa.

E a corrida longa fechou: **27 s, 8 m, 1 inversão, deriva final 0,0°**. É o
transiente da malha assentando, não ciclo-limite.

### 🔴 Duas razões estruturais, e eu devia tê-las visto ANTES de varrer

1. **O feedforward cancela o arco por construção.** A placa fingida usa
   `curvatura_frente = −0,817` e o compensador usa `curv_frente = −0,817` — o
   mesmo número. Não sobra erro para o integrador, então `ki` ali só podia
   piorar. Testado também **descasado** (planta em −0,9116 contra ff de −0,817,
   que é a situação real do robô): continuou 1 inversão.
2. **BO-4** — a boba do simulador é um patim, e o contato dela não participa da
   dinâmica. Oscilação puxada por roda boba arrastada **não pode** aparecer ali.
   E a boba é a única peça que troca de papel entre frente e ré, que é a
   assinatura do defeito de rumo deste robô desde 04-08.

### O que isto NÃO diz

Não diz que `ki` menor é pior no robô. Diz que **o simulador não pode arbitrar**.
No robô o ff (−0,817) difere da planta (−0,9116) e o integrador tem trabalho
real — exatamente o que aqui ele não tem.

➡️ **`docs/PLANO_SINTONIA_RUMO.md`** (novo): a sintonia vira sessão de campo, com
a varredura de `ki` (12 corridas), as duas réguas, os critérios de sucesso e —
o mais importante — **o que fazer se `invs` também não mudar lá**: nesse caso o
S não é do ganho, e o caminho passa a ser o BO-4 (o vídeo da traseira, filmado
em 04-08 e nunca trazido para o repo, é o item mais barato que falta).

## 🎚️ 2026-08-06 — O S tem número: 0,94 s de tempo morto, e os ganhos caem 4,1×

O dono empurrou de volta, e com razão: *"vc tem certeza que com esses dados não
tem como fazer um ki bom? ... teoricamente isso é fácil de fazer e nem precisa
de um simulador tão preciso"*. **Tem como, e o simulador não era necessário.**

### Primeiro, uma correção de leitura minha

Eu tinha contado inversões e parado aí. Não olhei a **envoltória**:

```
corrida    1ª excursão   2ª excursão   cresceu   meio-período
a             −2,97°        +6,46°      2,18×       2,38 s
b             −6,47°       +12,04°      1,86×       2,50 s
c             −5,43°       +11,84°      2,18×       2,50 s
média                                   2,07×       2,46 s
```

**A oscilação do robô CRESCE.** Não é a malha assentando — é instabilidade. Três
corridas, o mesmo fator.

### O tempo morto sai do próprio dado, por duas rotas

Com o PI que estava rodando (`kp=1,0`, `ki=0,5`), oscilar a 1,277 rad/s exige
**0,94 s** de atraso puro no laço. E esse número **não foi ajustado para caber**:

```
atraso de liga      0,27 s   (01-08, n=4)
atraso de desliga   0,52 s   (04-08, n=3)
soma                0,79 s   + pose a 10 Hz e janela de 0,2 s   ≈ 0,94 s
```

Duas rotas independentes, mesmo número. **O mecanismo está confirmado.**

### Quanto reduzir também sai do dado

Crescer 2,07× por meio-período põe o ganho de laço em ~2,07 na travessia de
fase; ele precisa ficar abaixo de 1. **Reduzir 4,1×, os dois juntos** (a razão
`ki/kp` não muda — é ganho a menos, não controlador diferente):

```
kp  1,00 -> 0,25        ki  0,50 -> 0,12
```

### 🔴 A planta de brinquedo do teste tinha o MESMO ponto cego

O `_roda_planta` do `test_lei_de_reta.py` já modelava atraso — mas de **0,26 s**,
que é só a latência de liga. Com esse valor **ela não oscila com ganho nenhum**.
Era por isso que o S não aparecia em lugar nenhum: nem no Gazebo, nem aqui.

Corrigido para os 0,94 s medidos, ela reproduz o fenômeno e vira **o único lugar
do projeto onde a estabilidade do rumo pode ser julgada sem o robô**:

```
                       atraso 0,26 s (antes)        atraso 0,94 s (medido)
ganhos ANTIGOS         picos 4,6 · 0,2 · 0,0        15,2 · 15,3 · 12,2 · 10,0 · 8,2
ganhos NOVOS           picos 8,2 · 0,3 · 0,1        16,5 · 0,4 · 0,2 · 0,1
```

### ⚠️ Um efeito colateral que o teste pegou, e o conserto errado que eu tentei

Baixar `ki` 4,1× **encolhe junto a autoridade do integrador** (`ki · int_max`
caiu de 0,30 para 0,072 rad/s). Subi o `int_max` para 2,5 para preservar o
produto — e o teste derrubou: **o sino voltou** (9° de segunda excursão).

Com tempo morto, `int_max` não é só teto de autoridade: é a proteção contra
**windup**, que é o que produz sobrepasso. Medido:

```
int_max   ff certo: 2ª exc | curvatura      ff 25% errado: curvatura
  0,6         0,4°  | −0,0012                    0,0007
  1,0         7,1°  | +0,0061                   −0,0026
  2,5         9,0°  | +0,0076                   +0,0053
```

**Fica em 0,6.** A curvatura — o critério da 011 — sai três ordens de grandeza
abaixo do limite nos dois casos. O preço é que com o ff 25% errado o rumo
assenta ~6,8° fora da referência capturada. **O conserto disso é o feedforward
estar certo, não o integrador brigar contra tempo morto.**

E isso me obriga a retirar a retirada de 05-08: eu tinha dito que corrigir o
`curv_frente` para a planta medida pioraria, porque o resíduo saiu positivo.
Aquele `+0,0417` é a **média de uma oscilação crescente cortada em 1,2 m** — ele
depende de onde a corrida terminou e não diz nada sobre o sinal do erro do ff.

### O que ficou travado em teste

Cinco testes novos, dois verificados por mutação: com o atraso de volta em
0,26 s o teste do sino falha (a planta era cega), e com os ganhos de volta em
1,0/0,5 o teste de assentamento falha. Mais o que compara os defaults do nó com
os da lei — default duplicado é default que deriva.

**522 testes verdes** (eram 517).

⏳ **A conferir no robô** (`docs/PLANO_SINTONIA_RUMO.md`): a mesma corrida tem de
mostrar a amplitude **decaindo** em vez de crescer. Se continuar crescendo com
estes ganhos, o S não é do laço e o caminho passa a ser o BO-4.

## 🔮 2026-08-06 (2ª leva) — O preditor de Smith entra, e perde para o detune

A saída que o dono descreveu (*"não dá pra ter um código feito pra arrumar a
direção dele sem ficar fazendo S?"*) tem nome e está implementada: **preditor de
Smith**, em `lei_de_reta.py`, **opt-in e desligado por padrão**.

### Como ele funciona aqui

Em vez de baixar o ganho para tolerar o atraso, ele **desconta o que já está a
caminho**: a malha enxerga `yaw + (giro que os comandos em trânsito ainda vão
produzir)`. Com o atraso fora de dentro da malha, o ganho poderia voltar a subir.

**Uma decisão fina que faz toda a diferença: ele prevê SÓ A CORREÇÃO, não o
feedforward.** O efeito futuro do ff é, por construção, cancelado pelo arco
futuro do corpo — prever um sem o outro criaria viés do tamanho do próprio ff,
que é a maior parcela da saída. Travado em teste.

### 🔴 E o veredito medido: ele perde

```
configuração                     excursões (graus)       assenta   rumo
ANTIGOS 1,0/0,5 sem preditor     15,2 15,3 12,2 10,0      39,9 s   +0,94°
ANTIGOS 1,0/0,5 COM preditor     15,3  2,3  3,7  3,6      nunca    +3,65°
NOVOS 0,25/0,12 sem preditor     16,5  0,4  0,2  0,1       9,6 s   +0,06°
NOVOS 0,25/0,12 COM preditor     16,7  3,4  3,7  3,6      nunca    +3,63°
```

Ele **mata a divergência** dos ganhos antigos (12° viram 3,6°) — faz o que
promete. Mas deixa ondulação **sustentada** de ~3,6° e um viés de rumo, onde o
detune simples assenta abaixo de 0,1° em 9,6 s.

Conferido que não é defeito de parametrização: o grampo não está segurando
(mesmo resultado de 0,35 a 2,0 rad) e subir o `preditor_ganho` de 1,0 para 1,4
piora monotonicamente.

⚠️ **Ressalva que a comparação não resolve**: a planta de brinquedo aplica o
arco IMEDIATAMENTE enquanto o wz comandado chega atrasado; no robô os dois
nascem do mesmo movimento e chegam juntos. Essa assimetria pode penalizar o
preditor injustamente. É por isso que ele **fica no código** — e não é por isso
que ele fica ligado.

### O que ficou travado

Oito testes, incluindo o caso do **modelo errado** (preditor achando 0,94 s
contra planta de 1,4 s: degrada, não explode) — um preditor testado só com o
modelo certo é um preditor cuja pior falha ninguém viu. Mais o que trava o
veredito da comparação, para ninguém ligar o default por preferência. Mutação:
fazendo `yaw_efetivo` devolver o yaw cru, só o teste do sino falha.

**144 testes no `robot_motion`** (eram 136); **530 na suíte**.

➡️ `PLANO_SINTONIA_RUMO.md` ganhou a seção do preditor: se sobrar sessão, três
corridas desempatam. Se ele não ganhar no robô, fica desligado para sempre e
isso vira registro.

## 🤖 2026-08-06 (3ª leva) — A ida ao robô: o S morre, o pivô é bimodal, e o teste D cai por falta de uma transformada

Sessão de bancada na cerâmica da sala, bateria 41,16 → 40,92 V. **Dezoito
corridas.** As três previsões que o dia foi testar tinham resposta ao fim da
tarde, e duas passaram.

### 🟢 O passo bloqueante passou

`wheel_separation = 0.2700` **no robô**. A descrição nova (`robo2.urdf.xacro`)
foi trocada em 05-08 e nunca tinha rodado na máquina; comparar xacro no dev não
é verificação no robô, e bitola errada enviesaria tudo sem sintoma nenhum.
Reconferido depois do reboot no meio da sessão, em vez de assumir que seguia
válido.

### 🟢 Os ganhos reduzidos 4,1× matam a oscilação divergente

Seis corridas de reta, três por condição, com o compensador **morto e subido de
novo** entre elas (`param set` não pega nesse nó) e a primeira linha do log
conferida nas duas.

```
                 invs   período medido   envoltória 1ª→2ª
VELHOS  a          1      —                2,13×  cresce
        b          2     2,28 s            2,53×  cresce
        c          2     2,44 s            1,87×  cresce
NOVOS   a          0      —                monotônico
        b          1      —               (2,03× é deriva, não ciclo)
        c          0      —                0,58×  decai
```

**A evidência limpa é o período, e ela vem do `mede_o_s`, não de script novo:**
medido em 2 das 3 corridas velhas (2,28 e 2,44 s, dentro dos 2,2–2,4 s de
05-08) e em **nenhuma** das novas. Sem período não há ciclo.

O controle do dia reproduziu 05-08 quase exato (1,87–2,53× hoje contra
1,86–2,18× então): a comparação é **interna**, não entre dias — que era a
armadilha de uma varredura ao longo de uma tarde.

O dono, a olho: *"ele tá fazendo um S mas tá reto, tá bom."* Em 05-08 o mesmo
olho viu o S divergir.

### 🔴 O critério de curvatura falhou nas duas condições — e agora se sabe por quê

```
NOVOS   média 0,0764   faixa 0,023–0,108
VELHOS  média 0,0707   faixa 0,032–0,107
```

São a mesma coisa. Baixar o ganho 4,1× **não mexeu na curvatura**, porque o
arco não vem do laço: vem do `ff`, idêntico nas duas condições (−0,817 1/m). O
limiar `|curvatura| < 0,05` mede erro de **feedforward**, não estabilidade —
ele nunca ia separar essas condições. A corrida `novos-a` assentou em **6,81°**,
contra os "~6,8°" que o `ESTADO_PROJETO` previu para o ff 25% errado.

➡️ O conserto é acertar o `curv_frente`. Nenhum ganho corrige isso.

**Hipótese retirada:** o S era do laço, não da boba (BO-4). O vídeo da traseira
continua valendo, mas deixou de ser urgente.

### 🟢 O pivô é bimodal em `liga 0,10` e unimodal em `liga 0,30`

```
              giro    pico   t_parar
liga0.10-a    3,3°    0,12    0,76
liga0.10-b    2,2°    0,11    0,86     BIMODAL — 2,2 a 29,7°  (13×)
liga0.10-c   29,7°    0,89    1,38
liga0.30-a   69,7°    1,49    1,94
liga0.30-b   67,6°    1,52    2,16     UNIMODAL — 59,2 a 69,7°  (±8%)
liga0.30-c   59,2°    1,44    1,86
```

Mesma máquina, mesma tarde, só muda a largura do pulso. Com 1,0 ciclo do laço a
fase decide e o giro se parte em dois modos separados por 13×; com 3,0 ciclos
ele se repete dentro de ±8%. É a assinatura da quantização de 10 Hz.

**O pico de `wz` separa os regimes melhor que a amplitude**: nas corridas baixas
o pico foi 0,11–0,12 rad/s contra os **0,6 comandados** — o pulso morreu antes
de vencer a inércia — e na alta foi 0,89, **acima** do comandado.

⚠️ **Ressalva ao modelo:** o modo alto deu ~30°, não os ~16° previstos. Quase o
dobro, compatível com pegar 2 ciclos e não 1. O modelo acerta a **estrutura** e
erra a **escala** por ~2×. O próximo refino do simulador tem alvo.

A amostra única de 05-08 (2,7°) era do modo baixo. Com n=1 a conclusão teria
sido "nada mudou" — a armadilha do roteiro, confirmada na prática.

### 🟡 O preditor de Smith EMPATA no robô — e o desempate não coube na sala

```
                    invs   período medido   amp média   curvatura
VELHOS  1.0/0.5     1,2,2      2 de 3         12,5°       0,0707
PREDITOR 1.0/0.5    1,0,1      0 de 3          9,0°       0,0882
NOVOS   0.25/0.12   0,1,0      0 de 3          8,6°       0,0764
```

Contraria a bancada matemática, onde ele perdia claro. No robô os dois são
indistinguíveis dentro do espalho, e **ambos** matam a divergência.

🔴 **O que o empate não resolve, e isto é o resultado honesto:** a diferença
prevista é entre ondulação **sustentada** e **assentar**, e ela só aparece em
corrida **longa** — o próprio `mede_o_s` avisa que `invs` depende da duração.
Todas as corridas de hoje duram 4,7–5,0 s porque a trava de 1,2 m corta, e a
cerâmica da sala não dá mais espaço. **O desempate que a sessão foi buscar não
coube no espaço disponível.**

**Decisão provisória:** preditor fica desligado. Em empate técnico ganha a opção
que não depende de modelo — e o próprio nó imprime isso ao subir. Reforça a
escolha o pivô de hoje ter mostrado o modelo errando escala por ~2×. Não é
"desligado para sempre": o critério que fecharia a questão exige corredor longo.

### 🔴 O teste C falhou, e meu primeiro diagnóstico estava errado

O `bin/robot-key` **não sobe**: o script tem `set -u` e os `setup.bash` do
colcon/ament leem variáveis sem default (`COLCON_TRACE`,
`AMENT_TRACE_SETUP_FILES`, e seguiria). Contornado rodando o `ros2 run` direto.

Com o teleop no ar e o dono no teclado, **nada aconteceu no robô**. O gravador
novo (`tools/banco/homem_morto.py`, escrito nesta sessão com o robô desligado)
fechou a questão — e desmentiu o que eu tinha afirmado:

```
amostras por fonte: {'roda': 439}    em 44 s
```

Eu havia dito que "o teleop está vivo publicando zeros e não lê as teclas".
**Errado.** `/key_vel` não publicou **nada**, nem zero — não há uma única
amostra dessa fonte no CSV. O defeito não está no `le_tecla()`; está antes
disso, no teleop não chegar a publicar. Fica em aberto, com dado.

### 🔴 E o teste D cai por falta de UMA transformada

O robô não saiu do lugar (3 mm com comando de 0,25 m/s). Foram três hipóteses,
duas derrubadas por medida:

1. *o reflexo parou* — **não**: a zona é `x ∈ [−0,28, +0,49]` e a cadeira estava
   a ~1,1 m, fora dela;
2. *o `heading_controller` disputava `/auto_vel_raw` publicando zero* — plausível
   (ele publica lá), morto para testar, **e o robô continuou parado**;
3. **a raiz**: não existe TF `odom → base_link`.

```
odom -> base_link        : "frame does not exist" / árvores desconectadas
base_link -> livox_frame : OK, 0,420 m        ← o lidar no lugar medido
/livox/lidar             : 8 Hz               ← a nuvem está viva
```

O FAST-LIO publica `/Odometry` **como mensagem** e não publica a transformada.
Sem ela a árvore TF fica partida, e cai em cascata: o `planner_server` não
ativa, o **`lifecycle_manager` aborta o bringup inteiro**, e o
`collision_monitor` — que está na mesma lista — nunca é ativado. Ativado na mão
(`inactive` → `active`), ele passou a receber e **continuou sem publicar nada,
nem zero**, porque precisa transformar a nuvem para o corpo
(`base_shift_correction: True`).

⚠️ **O `PLANO_TESTE_ROBO` está errado ao listar o teste D como executável hoje.**
Ele diz que o reflexo "não sabe o que é `map`" — verdade sobre o algoritmo,
falso sobre a operação: o `collision_monitor` está amarrado ao mesmo
`lifecycle_manager` que o Nav2 derruba.

Sensor bom, nuvem boa, cadeia de tópicos inteira e conectada (conferida elo a
elo com `topic info -v`). Falta uma transformada.

### Achados de infra que custaram tempo hoje

- **O NUC cai junto com o robô.** Ele parecia ter alimentação separada; não tem.
  Um deploy morreu no meio (`No route to host`) e o NUC voltou com `up 0 min`.
  Nada foi perdido porque os dados iam para o `origin` em levas.
- **`/tmp/logs` não sobrevive ao reboot** — o `nohup` falhou silenciosamente e a
  base não subiu; o `--checar` reprovou e recusou medir, que é para o que existe.
- **`pgrep` casando com a própria linha do ssh**, de novo, agora com
  `teleop_teclado`. O colchete protege contra o `pgrep`, não contra o resto do
  comando. `ros2 node list` foi a leitura confiável.
- **`pkill` matando a própria sessão ssh** antes de derrubar a pilha. Matar por
  PID, como manda a lição das três pilhas órfãs.

### O que a sessão deixa aberto

| item | estado |
|---|---|
| `curv_frente` errado (~0,08 1/m de arco) | **o conserto de maior valor**; nenhum ganho resolve |
| TF `odom → base_link` | bloqueia Nav2, `collision_monitor` e o teste D inteiro |
| teleop não publica em `/key_vel` | teste C item 1 pendente, agora com dado |
| `bin/robot-key` com `set -u` | uma linha |
| desempate do preditor | precisa de corredor longo |
| `heading_controller`: pivô indisponível | pede 1,48 rad/s, teto 1,00 — e o robô **faz** 69,7° com `liga 0,30` |
| vídeo da traseira | segue barato, deixou de ser urgente |

## 2026-08-07 — O costmap passa a enxergar o Livox (sessão de dev, sem robô)

Sessão inteira na máquina de dev, robô desligado. O dono perguntou o que dava
para avançar sem máquina, e a resposta estava no `ESTADO`: dos quatro bloqueios
de 06-08, dois eram de dev e já tinham sido feitos na véspera (`tf_odom`,
`robot-key`). O que sobrava de maior valor era o Nav2 — e ao ir olhar apareceu
um buraco que não estava na lista de ninguém.

### O buraco: o único consumidor da nuvem era o reflexo

O Mid-360 publica `PointCloud2` em `/livox/lidar` desde 24-07 no robô e desde
04-08 no simulador (decisão 012). **Os dois costmaps do Nav2 rodavam só com o
mapa estático.** O comentário no `nav2.yaml` ainda dizia *"o robô simulado ainda
não tem lidar"* — velho havia três dias.

Consequência: o robô não desviava de obstáculo novo, **parava** na frente dele.
A fatia B estava bloqueada por configuração, não por sensor.

Registro completo em `docs/decisoes/014-costmap-enxerga-a-nuvem.md`.

### O que a máquina corrigiu, e é o resultado mais útil do dia

**1. A camada só no local costmap NÃO resolve.** Era como eu tinha escrito, com
o raciocínio de que o local é quem dirige. Mundo `pista_surpresa.sdf`
(obstáculo em 2,00 · 6,50 que o mapa não tem), caminho de (2,0 · 5,0) para
(2,0 · 7,2):

```
                        caminho / reta   folga do centro
camada só no local       2,20 / 2,20      0,035 m   ATRAVESSA
camada nos dois          2,74 / 2,20      0,530 m   CONTORNA
```

Quem dirige via a caixa; quem planeja não. E isso não dá "desvio pior", dá um
robô que vai reto até o obstáculo e **trava lá**: o reflexo salva a máquina e o
replanejamento a 1 Hz devolve para sempre o mesmo plano ruim. Obstáculo só no
local costmap não produz desvio, produz travamento educado.

**2. `expected_update_rate` 0,30 → 0,50 s.** O 0,30 era conta de padaria (10 Hz
+ 3 quadros) e não sobreviveu à primeira corrida: `has not been updated for
0.43 seconds`. E a nuvem estava perfeita — 9,7 Hz, carimbo de 100,0 ms com
mediana = p90 = p99 = máximo, sem cauda (281 quadros). O atraso é do consumidor:
20 000 pontos por quadro. Isto **não é cosmético**: buffer vencido deixa a
camada não-current, e costmap não-current **para de atualizar**. Errar para
baixo aqui desliga a percepção com um aviso amarelo por sintoma.

### O que ficou provado, e como

Duas ferramentas novas, porque a pista antiga não conseguia provar percepção:
mundo e mapa saíam da MESMA planta, então "desviou porque viu" e "desviou porque
lembrava" eram indistinguíveis.

- `gera_pista.py` passa a escrever `worlds/pista_surpresa.sdf` — o mesmo mundo
  com dois obstáculos que **nunca entram no mapa**;
- `tools/banco/percepcao.py` — células letais do costmap onde o mapa diz LIVRE;
- `tools/banco/plano.py` — pede caminho por `compute_path_to_pose`, que
  **planeja sem mover o robô** (serve para o robô real com a bateria parada).

```
local_costmap   1 mancha: (2,00 · 6,28)  0,075 m²
global_costmap  2 manchas: (2,00 · 6,28) e (3,79 · 2,64)
```

A primeira é a face SUL da caixa (x 1,75–2,25 / y 6,25–6,75) — a única que o
lidar vê daquela posição, com o centróide batendo em x exatamente. A segunda é
o obstáculo do vão da porta, a 3,5 m: o alcance de 3,0 m do global funcionando.

⚠️ **O robô só conhece a face que viu** — 0,075 m² de uma caixa de 0,25 m². O
planejador está contornando uma lasca do obstáculo, não o obstáculo.

### Meia hora perdida num limiar, e vale registrar

A primeira leitura do `percepcao.py` acusou as paredes conhecidas como
"marcação que só o sensor explica", 16 cm deslocadas para dentro e com 0,35 m
de espessura. Fui atrás na nuvem crua, ponto a ponto: ela estava **certa** —
parede real em x = 0,20, pontos a 1,765–1,78 m do robô em (2,0 · 5,0),
elevações de −7,00° a +3,84°, exatamente a folha do sensor.

O erro era do meu instrumento: contei `>= 253` como letal, e **253 é
`INSCRIBED_INFLATED_OBSTACLE`** — inflação. Letal é 254. Os 35 cm de "obstáculo
inventado" eram o `robot_radius` de 0,32 pintado pela `InflationLayer`. Está
comentado no topo do `percepcao.py` para não morder de novo.

Segundo ajuste do mesmo instrumento: as faces das paredes reais apareciam como
marcação nova (parede em 0,20, mancha em 0,23) porque a célula marcada cai logo
FORA da parede rasterizada — ruído de 2 cm sobre grade de 5 cm. Entrou o
`--orla` (0,10 m, duas células), e aí sobra só o que é obstáculo de verdade.

### Decisão 013: o dono escolheu o caminho 3

**Medir a curvatura crua no começo de cada sessão** e passar `curv_frente` por
parâmetro. Barato, honesto, sem automação — vira passo do protocolo de bancada.
As três corridas sem compensador já são o experimento nº 2 do roteiro da
próxima ida.

### Estado no fim da sessão

**274 testes verdes** (eram 264), rodando por pacote: `robot_motion` 154,
`tools` 61, `robot_base` 47, `robot_planning` 12. Seis testes novos, quatro
verificados por mutação (Voxel→Obstacle, faixa de altura discordando do reflexo,
inflação deixando de ser a última camada, coluna de voxel mais curta que o
sensor).

⏳ **Nada disto rodou no robô** — vale a mesma ressalva da decisão 012, e mais
uma: no global costmap a marcação é **permanente**, então a deriva do LIO com a
TF `map→odom` fixa vira obstáculo fantasma acumulado. Seguro no simulador,
dívida no robô.

### 🗺️ 07-08 (2ª leva) — E o Nav2 do robô real não tem mapa

Fechada a 014, o próximo bloqueio ficou óbvio e é anterior a ela: a
`pilha.launch.py` sobe `map_server` com **a planta da pista SIMULADA** — sala de
12 × 8 m que não existe em lugar nenhum — e o `global_costmap` é `StaticLayer`
sobre isso. O cabeçalho da launch já avisava (*"no robô real isto não vale"*),
mas era aviso sem saída: não existia o "sem mapa" para escolher.

E a 014 tinha acabado de piorar o quadro: o costmap global passou a **misturar**
paredes fantasma do mapa errado com marcação real e permanente do Livox.

Entra `mapa:=nenhum` (decisão 015): sem `map_server` — e ele sai também da lista
do `lifecycle_manager`, que aborta o bringup se um servidor da lista não
responder, exatamente o que matou o `collision_monitor` em 06-08 —, sem
`static_layer`, e o global vira janela rolante de 20 × 20 m alimentada só pelo
sensor.

Feito como **overlay** (`config/nav2_sem_mapa.yaml`), não como segundo
`nav2.yaml`: copiar 300 linhas de racional comentado para editar duas chaves
seria o defeito da bitola de 29-07 num lugar novo. Há teste que falha se o
overlay redefinir geometria.

**Medido**, mesma pista e mesmo par de pontos da leva anterior:

```
                    caminho / reta   folga    manchas no global
com mapa              2,74 / 2,20     0,530 m   2 (as duas surpresas)
sem mapa nenhum       2,78 / 2,25     0,530 m   6 (as surpresas + as paredes)
```

Sem mapa, o costmap global é feito **só do que o sensor viu**, e as seis manchas
batem com a planta: parede oeste em 0,19 (real 0,20), divisória em 3,91 (real
3,90), parede norte em 7,80/7,81 (real 7,80), mais as duas surpresas. O robô
planeja sem mapa e chega ao mesmo desvio.

⚠️ **O custo, e quem opera precisa saber:** memória curta. Fora dos 20 m ele não
sabe de nada, e o que nunca viu conta como livre. Não é regressão — parede
fantasma no lugar errado não é conservadora, é aleatória.

### 🧟 A armadilha do dia: três pilhas rodando ao mesmo tempo

O perfil sem mapa "falhou" na primeira tentativa (`Failed to change state for
node: bt_navigator`, bringup abortado). **Não era o código.** Rodando o controle
com mapa, ele falhou também — no `map_server` — e aí ficou claro: `ros2 node
list` mostrava **3 `planner_server`, 3 `lifecycle_manager`, 5 `tf_map_odom`**.

Causa: eu matava os nós filhos por PID e **deixava o processo `ros2 launch`
vivo**. Ele não morre com os filhos, e cada nova subida empilhava mais uma
pilha. É a lição das três pilhas órfãs de 07-31 aparecendo por uma porta nova —
lá eram `fastlio_mapping` órfãos, aqui é o launch.

Duas leituras que enganam e vale registrar:

- **`pgrep -c` conta o próprio shell.** `pgrep -c -f "gz sim"` dava 2 com zero
  Gazebos vivos: o `-a` mostrou que quem casava era a linha de comando do
  próprio `bash -c`. Já está no apêndice do roteiro; mordeu de novo;
- **`ros2 node list` mostra fantasma.** Depois de matar tudo, com `ps` provando
  zero processos, ele ainda listava 23 nós — cache do **daemon**. `ros2 daemon
  stop && ros2 daemon start` limpa. Para saber o que está vivo de verdade, `ps`.

Refeitas as duas medidas com ambiente verificado por `ps`, e o controle com mapa
reproduz o número da leva anterior **exato** (2,74 / 2,20, folga 0,530, mesmas
duas manchas) — a refatoração da launch não mexeu naquele caminho.

**278 testes verdes** (eram 274): quatro novos para o perfil sem mapa, três
verificados por mutação (`static_layer` voltando ao global, geometria redefinida
no overlay, janela deixando de rolar).

### 🛫 07-08 (3ª leva) — O pré-voo, e uma leitura de 06-08 que estava errada

O dono avisou que vai ao robô hoje e pediu um script que testasse tudo. Nasceu
`tools/banco/checa_pilha.py`: 30 s, **não move o robô**, e responde item a item
se o que foi escrito sem máquina sobrevive a ela — uma pilha só, nuvem e taxa,
as duas TFs, fração de nuvem transformável, `lifecycle` dos quatro servidores,
perfil sem mapa, os dois costmaps marcando, e a cadeia de comando inteira. Cada
falha traz o conserto na própria linha, para não ter de procurar no roteiro com
a bateria correndo.

Os que MOVEM continuam separados e cada um espera o "pode": `ensaio.py`,
`plano.py` (que planeja parado), `homem_morto.py`.

🔵 **HIPÓTESE RETIRADA, e ela estava no registro de 06-08.** Rodando o pré-voo
contra o simulador, `/auto_vel` apareceu com ZERO mensagens e o script marcou
falha. Antes de aceitar, medi:

```
3 s de comando ZERO  em /auto_vel_raw  ->  /auto_vel recebeu    0
3 s de comando 0,05  em /auto_vel_raw  ->  /auto_vel recebeu  150
```

**O `collision_monitor` não republica comando nulo** — é como o Nav2 funciona.
Com o robô parado o `heading_controller` publica só zeros, então o reflexo cala
**por construção**.

Isso corrige o que a 3ª leva de 06-08 registrou. Lá está escrito que o
`collision_monitor`, ativado na mão, *"passou a receber e continuou sem publicar
nada, nem zero"*, e o silêncio foi usado como evidência de que ele não conseguia
transformar a nuvem. **O sintoma era esperado.** A TF faltava — isso segue de
pé, provado pelo `tf2_echo` e pelo `lifecycle` naquele dia —, mas aquele silêncio
não era prova de nada.

O script já embute as duas leituras que enganaram alguém aqui: conta processo
lendo `ps` (nunca `pgrep -c`, que casa com o próprio shell) e trata `/auto_vel`
calado como ⚠️, não ❌, quando a entrada é só zero.

**Rodado contra o simulador no perfil da sessão de hoje (`mapa:=nenhum`): 20/20.**
Suíte: **281 verdes**, três novos para o pré-voo.

### 🎚️ 07-08 (4ª leva) — A decisão 013 sai do papel: o ff do dia tem por onde entrar

Sessão de dev, robô desligado. O dono perguntou o que dava para fazer sem
máquina; levantei o que estava aberto e o item escolhido foi o mais barato dos
que **bloqueiam a próxima ida**.

🔴 **A escolha do caminho 3 estava registrada e não existia plumbing para ela.**
De manhã o dono decidiu medir a curvatura crua no começo de cada sessão e passar
`curv_frente` por parâmetro. À tarde, olhando o código:

- `compensador_rumo.py` declarava `curv_frente` com default **−0,817** — o valor
  de 04-08, exatamente o número que a decisão diz não valer como verdade;
- `pilha.launch.py` subia os dois compensadores (sim e robô) com **só**
  `use_sim_time` e `segura_rumo`;
- nenhum YAML carrega o número;
- sobrava `ros2 param set`, que o apêndice do roteiro lista como armadilha
  conhecida (não chega no nó; matar e subir).

Ou seja: o experimento nº 2 da próxima sessão produziria um número **sem
destino**. O protocolo tinha sido escolhido e a máquina não sabia recebê-lo.

🟢 **A ponte, em três pedaços, e o do meio é o que faltava.**

1. **`pilha.launch.py` ganhou `curv_frente`, `curv_re` e `curv_medido_em`**,
   repassados aos DOIS compensadores. Defaults iguais aos do nó — quem não passa
   nada sobe como sempre subiu.

   ⚠️ Os dois numéricos vão como `ParameterValue(..., value_type=float)`.
   Argumento de launch chega como TEXTO e o nó declarou `curv_frente` como
   double: passar a substituição crua derruba o compensador na subida com
   *parameter type mismatch*, e compensador que não sobe é o robô arcando
   0,82 1/m com a pilha inteira de pé. Conferido resolvendo a launch fora do
   ROS: `-0.9116 (float)` e `'2026-08-07' (str)` chegam tipados nos dois nós.

2. **`curv_medido_em` não entra na conta — entra no LOG.** O nó passou a
   registrar de onde veio o feedforward, e as duas saídas foram vistas vivas:

   ```
   [WARN] ff MEDIDO em 2026-08-07: curv_frente -0.9116 1/m. Se esta data não
          for a de hoje, o valor é de outra sessão e vale como herdado.
   [WARN] ⚠️ ff HERDADO: curv_frente -0.8170 NÃO foi medido nesta sessão. [...]
   ```

   É WARN nos dois casos de propósito: o `rosout` é como eu leio a bancada por
   ssh (o dono só roda), e um INFO se perde no meio do bringup do Nav2. O
   default do nó é `HERDADO`, então **subir sem medir se denuncia** — a classe
   de defeito da bitola (29-07): um número copiado que envelhece sozinho e não
   dá sintoma.

3. **`medir.py --resumo curvatura` passou a imprimir a linha pronta para
   colar**, com a data de hoje preenchida. Contra o dado real de 05-08:

   ```
   média = -0.9000   faixa -0.9310 a -0.8652   desvio 0.0274
   dispersão de 3% da média — as corridas concordam.
   ➡️ ros2 launch robot_motion pilha.launch.py mapa:=nenhum \
          curv_frente:=-0.9000 curv_medido_em:=2026-08-07
   ```

   ⚠️ **E ela se RECUSA a sair** com menos de três corridas, com dispersão acima
   de 5%, ou com frente e ré misturadas (são parâmetros diferentes, e diferem
   8x). O critério não é o de 15% do resumo: aquele pergunta *as corridas
   concordam?*, este pergunta *isto serve como constante do dia?* — e a resposta
   veio da medida, porque dentro do dia o robô repete em 2–3% (04-08 e 05-08).
   Linha colável impressa a partir de medida ruim é pior que nenhuma: ela seria
   colada.

**300 testes verdes** (eram 281), rodados por pacote: `robot_motion` 171,
`tools` 70, `robot_base` 47, `robot_planning` 12. Dezenove novos, **três
verificados por mutação** no `medir.py` (a trava de dispersão afrouxada para
100%, o sentido da corrida sempre 'frente', e o mínimo de três corridas
removido — cada mutação derrubou exatamente o seu teste e nenhum outro).

⏳ **Nada disto foi ao robô.** O que a próxima sessão confirma é operacional, não
físico: o experimento 2 imprime a linha, a linha sobe a pilha, e o `rosout` diz
`ff MEDIDO em <hoje>`. Se disser `HERDADO`, o número não chegou.

🔧 **Dívida vista de passagem, não paga**: rodar `ros2_packages/robot_motion/test`
e `tools/` no MESMO processo pytest derruba
`test_o_raio_de_chegada_do_nav2_bate_com_o_do_seguidor` — o `sys.path.insert` do
`test_lei_de_reta.py` faz o `path_follower` ser importado por um caminho em que
o import relativo quebra. É anterior a esta leva (confirmado com `git stash`) e
não aparece rodando por pacote, que é como a suíte é rodada aqui.

---

## 2026-08-10 — O S estava lá o tempo todo; a régua é que era curta

Sessão no robô, na sala. Doze corridas. Os dados estão em
`docs/dados/2026-08-10-{sessao,curva-crua,ff-velho}/`, cada pasta com o seu
`ambiente.txt`. **Bateria não foi lida** — pedi duas vezes e a sessão andou sem
ela; é a única condição do dia que ficou sem registro.

### O acesso, que custou meia hora e não devia

O robô não respondia. Varri a rede errada inteira (422 hosts vivos), casei
chaves de host contra o `known_hosts`, cheguei a apontar uma máquina que **não
era** o NUC e mandei o dono rodar `ssh-copy-id` nela — a senha foi recusada, e
foi só por isso que a chave dele não foi parar num host de terceiro. A causa era
outra: **o PC de dev estava no wifi errado**. Fica a regra: antes de procurar o
robô, conferir em que SSID a máquina está. `10.244.3.x` = "Trafico de banana".

### O deploy e o pré-voo — dois defeitos reais, e o primeiro destravou o Nav2

Deploy por bundle, `colcon build`, `sessao.py --checar` ✅ (`wheel_separation
0.2700`, `/Odometry` 10,0 Hz, Livox 9,99 Hz, uma pilha só).

🔴 **O `tf_odom` não publicava, e ele estava CERTO em não publicar.** O FAST-LIO
manda a pose no frame `body`, que não existe na árvore do URDF; o nó recusa
porque publicar seria embutir os 42 cm do Mid-360 sem sintoma nenhum. O
comentário do próprio código previa este caso. Conserto na hora:
`-p frame_da_pose:=livox_frame`. Depois dele, **os quatro servidores do Nav2
subiram `active` — a primeira vez no robô real** (em 06-08 o `lifecycle_manager`
abortava o bringup). Pré-voo foi de 10/19 para 16/19.

⚠️ Dívida: `body` é o frame da **IMU**, 5 cm do lidar (`extrinsic_T` do
`mid360.yaml`). Melhor que 42 cm, mas não é zero.

🔴 **A DECISÃO 014 ESTÁ INERTE NO ROBÔ REAL:**

```
/livox/lidar   publisher:  livox_ros_driver2/msg/CustomMsg
costmaps, collision_monitor e o pré-voo assinam  sensor_msgs/msg/PointCloud2
```

O FAST-LIO funciona porque lê CustomMsg — por isso a localização vai bem e a
percepção é **zero**. No simulador o lidar é `gpu_lidar` e publica PointCloud2:
a 014 foi escrita e aceita num ambiente onde o defeito não existe. Sintomas:
"nuvem NADA chegou" no pré-voo com `topic hz` medindo 9,96 Hz, e os dois
costmaps com 0 células letais.

⚠️ **Previsão falsificável (não testada)**: converter a nuvem **sozinho não vai
fazer os costmaps marcarem**. Com o `tf_odom` compondo a pose do sensor, o
`odom` fica na altura do sensor (`tf2_echo odom→base_link` deu **z = −0,477 m**),
o chão vai para z ≈ −0,42 e a faixa de altura do costmap (0,10–0,50) rejeita
tudo. São dois defeitos em série.

### Experimento 2 — a planta deriva 19% em 5 minutos

Seis retas cruas idênticas (`v=0,25`, corte em 1,2 m), mesmo ponto, mesmo rumo:

```
   +0,0 min  0,8395      +2,5 min  0,9175
   +0,9 min  0,8154      +4,8 min  0,9313
   +1,5 min  0,9358      +5,4 min  0,9687
                    ajuste +0,022 1/m por minuto (r = +0,80)
```

Mesma velocidade linear nas seis (0,254–0,264 m/s); o que muda é o giro (wz
médio −0,21 → −0,24). **Não é o mundo** — as seis partiram do mesmo rumo e do
mesmo pedaço de chão, e caimento de piso é força fixa no mundo.

➡️ **Isto atinge a decisão 013 em cheio.** Os 13,5% entre 04-08 e 05-08 que
motivaram o caminho 3 ("medir no começo da sessão") acontecem aqui em **cinco
minutos**. Uma medida por sessão envelhece dentro da própria sessão.

🔵 **O dono cortou a investigação de causa, e estava certo:** *"não é isso, está
focando no bagulho errado, o compensador deve conseguir identificar o erro atual
para ajeitar, se tem essa diferenciação aí, por isso um PID."* Térmico contra
bateria não muda o que fazer — o ff é um número parado e a planta não é. A
sessão virou para testar a tese dele.

### A tese testada: quanto a malha absorve de um ff velho?

A conta dizia que caberia: `ki·int_max = 0,072 rad/s` de autoridade, e cancelar
a deriva do dia (Δcurv 0,15) a v=0,25 custa 0,038 rad/s. Três corridas de 1,2 m
com o ff **velho** de propósito (−0,8275, o que uma medida do começo teria dado,
contra planta em ~0,94):

```
   comp-ffvelho-a  +0,0546     "foi reto para um caralho" (o dono, a olho)
   comp-ffvelho-b  +0,0680
   comp-ffvelho-c  +0,1841
```

As três com a **mesma forma**: mergulham 3–6°, cruzam zero, e são cortadas
**ainda subindo**. Hipótese de integrador atravessando corridas: **morta** — o
`ensaio.py` publica `(0,0)` ao parar e o `_descarta()` zera integral e
referência.

### 🔴 O ACHADO DO DIA — a régua de 1,2 m aprova robô oscilando

Corrida longa (2,5 m, 10 s), ff velho:

```
   0 → −13,5° (2,7 s) → +22,3° (8,0 s) → +13,1° no corte
   envoltória CRESCE 1,65x     meio-período ~5,3 s
```

E então **a mesma corrida**, truncada em 1,2 m de percurso, no mesmo
`medir.py --resumo curvatura`:

```
   medida em 1,2 m  ->  −0,0162   PASSA no critério da 011 (|curv| < 0,05)
   medida em 2,5 m  ->  +0,0882   REPROVA
```

Mesmo robô, mesma corrida, mesmo instrumento — **só a régua mudou**. O corte de
1,2 m cai no cruzamento de zero do S. É isto que explica o "primeiro foi tão bom
e agora só piora" que o dono estranhou: G, H e I não mediam qualidade, mediam
**em que ponto do S a corrida foi cortada**.

➡️ **Mudança de protocolo**: corrida de aceitação tem de durar ao menos um
período (~10 s / 2,5 m). O `+0,0417` que deu "aceito" em 05-08 foi medido com a
régua curta — a releitura de 06-08 já suspeitava, e agora está provado com a
mesma corrida medida de duas formas.

### O ff do dia melhora 2,7×, e ainda assim não assenta

```
   ff VELHO −0,8275    −13,5° → +22,3°     excursão 35,8°
   ff HOJE  −0,9383      0,0° → +13,0°     excursão 13,0°
```

Com o ff de hoje ele não mergulha: sai **sobrecorrigindo** para a esquerda,
chega a +13° aos 6,7 s e começa a voltar. O dono, a olho: *"foi melhor essa
reta, mas com o tempo jogou pra esquerda"* — o olho e o LIO concordam.

### Veredito e o que fica para a próxima

- fechar a malha **não** compensa um ff errado: com ff velho a envoltória cresce;
- o ff do dia melhora 2,7× e **não assenta em 10 s**;
- logo o conserto não é medir o ff mais vezes — é o compensador **estimar a
  curvatura enquanto anda** (caminho 2 da decisão 013), que é exatamente o que
  o dono pediu. Fica para a próxima sessão de dev, com o robô desligado.

Aberto também: o conversor CustomMsg → PointCloud2 e a altura do `odom`, que
juntos destravam a percepção (e o teste D, que hoje não tinha como rodar).

---

## 2026-08-11 — O ff deixa de ser um número e vira uma estimativa

Sessão de dev, robô desligado. Decisão **016**. **311 testes verdes** (eram
300), por pacote: `robot_motion` 182, `tools` 70, `robot_base` 47,
`robot_planning` 12. Onze novos, **cinco verificados por mutação**.

### O que foi construído, e por quê nesta forma

O dono cortou a caça à causa da deriva de 10-08 e apontou o alvo: *"o
compensador deve conseguir identificar o erro atual para ajeitar"*. O
diagnóstico que fecha com os dados: **o integrador já identifica o erro, mas na
unidade errada e com a memória errada** — ele é rumo acumulado [rad·s], vive
num laço com 0,94 s de tempo morto, e o `_descarta` o zera a cada parada. Cada
corrida reaprende do zero o que a anterior sabia.

A mudança é de **escala de tempo**, não de ganho: o que o integrador segura em
regime é drenado devagar para a `curv_*`, que é curvatura [1/m] e sobrevive à
parada.

```
transf = integral · dt / adapta_t        [rad·s]
Δcurv  = −(ki · transf) / v_real         [1/m]
integral −= transf
```

A drenagem é **sem solavanco por construção**: o ff cresce exatamente o que o
termo integral encolhe, então no instante da transferência o `wz` de saída não
muda. Isso não é elegância — degrau de comando num laço com 0,94 s de tempo
morto é como se fabrica a oscilação que o estimador veio matar.

Opt-in (`-p adapta:=true`), grampeado a ±0,5 1/m da semente, e não estima com
`v_real < 0,05 m/s`. O nó publica `curv_hat` no `rosout` a cada 2 s, porque a
diferença entre "aprendeu" e "encostou no grampo" não aparece no comportamento:
o robô anda torto dos dois jeitos.

### 🔧 A bancada de teste estava mentindo, e o teste que falhou é que mostrou

O teste "a corrida seguinte já começa corrigida" reprovou com **13,2° contra
13,6°** — quase nenhuma melhora, mesmo com o estimador já convergido
(`curv_hat = −0,9407` contra planta −0,94). A conta explicou: `0,94 s × 0,244
rad/s = 13°`. **A excursão inteira era a fila de atraso começando vazia** — o
`_roda_planta` aplica o arco desde o instante zero enquanto o comando chega
0,94 s depois.

É a ressalva que o próprio `lei_de_reta.py` já registrava no bloco do preditor
("no robô os dois chegam juntos") e que o robô confirmou em 10-08: a corrida com
o ff fresco começou **sem mergulho nenhum**, o que seria impossível se o arco
agisse antes do comando. Robô parado não arca, porque não anda.

O ajudante novo (`_roda_com_v_real`) atrasa os dois juntos. O `_roda_planta`
antigo ficou como está, com os testes que ele já sustentava.

### 🔴 Dois erros meus na sessão, os dois de ferramenta

**1. Apaguei minha própria implementação com `git checkout --`.** A rotina de
mutação desfazia cada mutação com `git checkout -- <arquivo>` — que restaura o
**último commit**, e o estimador ainda não estava commitado. As mutações 2, 3 e
4 daquela leva rodaram contra um arquivo já sem estimador, e os "11 failed" que
elas produziram não provavam nada. Refeito com cópia de segurança em vez de
`git checkout`, e as cinco mutações passaram a derrubar exatamente o seu teste.

**2. Bytecode velho fez a suíte reprovar um arquivo correto.** Depois de
restaurar o fonte, dois testes seguiam falhando com `adapta_t = 0.8` enquanto o
arquivo dizia `8.0`. Causa: `adapta_t=8.0` e `adapta_t=0.80`… a mutação anterior
(`8.0` → `0.8`) tinha **o mesmo número de bytes**, e a restauração caiu no mesmo
segundo da escrita do `.pyc`. Python valida bytecode por (mtime, tamanho): os
dois bateram e ele seguiu usando o compilado da mutação.
➡️ **Em mutação, limpar `__pycache__` entre as rodadas** — e desconfiar de
teste que reprova um arquivo que você acabou de conferir a olho.

### O que o mecanismo promete, e o que ele NÃO prova

Três corridas de 10 s com a planta derivando +0,022 1/m por minuto:

```
                corrida 1     corrida 2     corrida 3     curv_hat
SEM estimador   pico 4,1°     pico 4,1°     pico 4,1°     −0,8275 (parado)
COM estimador   pico 4,1°     pico 1,2°     pico 0,4°     −0,9383
```

⚠️ **Os valores absolutos são otimistas**: a mesma bancada dá 4,1° onde o robô
fez 13–22° em 10-08. Ela erra o sobrepasso por 3,7× — é otimista justamente onde
este estimador precisa ser julgado. O que vale é o **formato**: sem estimador
toda corrida repete o mesmo erro; com ele, cada uma começa melhor que a
anterior. **Quem arbitra é o robô**, com corridas de 2,5 m (nunca 1,2 m).

### 11-08 (2ª leva) — a percepção sai do papel: dois defeitos em série

Mesma sessão de dev, robô desligado. Decisões **017** e **018**, as duas vindas
do pré-voo de 10-08. **327 testes verdes** (eram 311), por pacote:
`robot_motion` 185, `tools` 70, `robot_base` 60, `robot_planning` 12.

🔴 **017 — o contrato da nuvem era um nome, não um tipo.** `/livox/lidar` sai do
driver como `CustomMsg` e os consumidores assinavam `PointCloud2`: nunca
receberam nada. O comentário da ponte do Gazebo explicava o erro com todas as
letras — *"remapeada para `/livox/lidar`, o MESMO nome do driver real (…) quem
consome não sabe a diferença"*. **Um tópico é (nome, tipo)**; igualar só o nome
escondeu a diferença por três semanas, e fez a decisão 014 nascer inerte.

Entra `/livox/pontos`, sempre `PointCloud2`: no robô um nó novo converte
(`robot_base/nuvem_pontos.py`, na `localizacao.launch.py`), no simulador a ponte
publica direto. O ponto `(0,0,0)` — que o Mid-360 emite quando o raio não volta
e que no frame do sensor é **o próprio robô** — é descartado, senão o costmap
marcaria célula letal em cima do robô a cada quadro.

⚠️ **Nenhum dos testes de config pegou isto, e eles são muitos**: todos
conferiam que os consumidores concordavam ENTRE SI, e concordavam. Faltava
perguntar *quem publica, e em que tipo*. Três testes novos fecham isso.

🔴 **018 — o `odom` estava na altura do sensor.** O `z = −0,477 m` medido ontem
não era detalhe: compondo só à direita, a origem do `odom` fica em cima do
Mid-360, o chão vai para z ≈ −0,42 e a percepção do Nav2 rejeita a nuvem em dois
lugares independentes (faixa de altura e `origin_z` da `VoxelLayer`, os dois no
frame global). Passa a pré-compor com a inversa: `odom` é a pose do `base_link`
na largada.

🔧 **A cobertura estava fina e a mutação mostrou**: as duas primeiras mutações
da inversa derrubavam **um teste só**, porque todas as travas usavam o sensor
sem rotação. Com um oráculo em matriz 4×4 (implementação independente) e um
sensor **inclinado**, as mesmas mutações passam a derrubar três.

⏳ **Previsão que separa as duas**: a 017 sozinha **não** faz os costmaps
marcarem. Se marcarem só com ela, minha hipótese sobre a faixa de altura está
errada e a suspeita seguinte é a `VoxelLayer`, não a altura.

### 11-08 (3ª leva) — O ROBÔ ANDA RETO, e o estimador não é o motivo

Sessão no robô, 13 corridas (3 cruas + 10 de 2,5 m). Dados e condições em
`docs/dados/2026-08-11-estimador/ambiente.txt`. Bateria 40,17 → 40,65 V.

🟢 **A percepção acordou no robô real — as decisões 017 e 018 funcionam.** O
pré-voo, com o robô parado, deu **20/20** (o único ❌ é o falso positivo do
`bash -c` do ssh contado como segunda pilha):

```
                       10-08            11-08
local_costmap        0 células      138 células letais (0,35 m²)
global_costmap       0 células      504 células letais (1,26 m²)
nuvem /livox/pontos     —           10,3 Hz · 10 661 pontos · 100% transformável
odom → base_link     z = −0,477 m   z = −0,060 m
```

⚠️ **A previsão que separava as duas ficou sem teste**, e isso é culpa do
planejamento, não do robô: elas entraram **juntas** no mesmo deploy. Para
falsificar "a 017 sozinha não marca" seria preciso reverter a 018 e rodar de
novo — não vale a bateria, e o registro fica assim, honesto.

🔴 **O ENSAIO DO ESTIMADOR: a previsão passou e o veredito é NEGATIVO.** Foi o
A-B-A, decidido na hora, que virou o resultado.

```
na ordem do tempo →   controle (adapta OFF)    8,9°   21,1°   18,4°
                      adapta ON               10,3°   10,1°    8,2°
                      VOLTA ao controle OFF    8,1°    6,2°
```

A previsão pré-registrada era *"com estimador, a corrida 2 menor que a 1 e a 3
menor que a 2"*. **Ela passou** — 10,3 > 10,1 > 8,2 — e passar não bastou: as
duas corridas **sem** estimador, rodadas logo depois, deram 8,1° e 6,2°, as
melhores do dia. O robô melhorou a tarde inteira **independentemente da
condição**. O que a sequência a→b→c mostrava era **ordem**, não mecanismo.

➡️ **A lição de método é maior que o resultado**: uma previsão falsificável
sobre uma sequência temporal não protege contra confundimento de ordem. Só o
retorno à condição de controle protege. Custou 2 corridas.

✅ **O mecanismo AGE — isso está provado, e é a metade que sobrevive.** O
`curv_hat` andou `−0,8275 → −0,7561 → −0,7380 → −0,6935` sem nunca encostar no
grampo (±0,50 da semente). O nó faz o que a decisão 016 diz que ele faz.

🔵 **E ele anda para o lado ERRADO.** A planta crua do dia mediu **−0,9145**
(mais curvatura) e o estimador foi para **−0,69** (menos). Duas leituras
possíveis, nenhuma testada: (a) o ff efetivo em malha fechada não é a curvatura
crua, e o estimador está achando o valor certo para o laço; (b) o sinal da
drenagem está invertido e o que segurou o rumo foi o termo proporcional. **A
diferença importa** e se resolve sem robô, na planta de brinquedo, semeando com
erro dos dois lados.

🟢 **O NÚMERO DO DIA, que é o que o dono viu:** 6,2° a 10,3° de excursão em
2,5 m, com deriva final de ~1°, contra **35,8°** em 10-08 com o mesmo ff velho.
Nas palavras dele: *"no início joga um tico pra esquerda depois estabiliza
lindamente"* e *"o robô anda reto"*. Em 10-08 nenhuma corrida assentava.

⚠️ **E ninguém sabe por que ele melhorou.** A planta crua repetiu 6% de
dispersão entre três corridas seguidas (`−0,8867 · −0,9790 · −0,8777`) e o
`medir.py` **recusou** transformá-la em feedforward, corretamente. O robô das
17 h não é o robô das 19 h. **A previsão barata para a próxima sessão**: três
corridas de 2,5 m com o robô FRIO, no começo do dia, com esta mesma
configuração. Se der ~6°, a melhora é do controlador; se voltar aos 18–21°, ela
era térmica ou de assentamento e o problema não está fechado.

🔧 **Três armadilhas de operação, todas já conhecidas e todas mordendo de novo:**

- **a placa estava DESLIGADA e a base subiu igual.** `/hoverboard/connected` =
  false, bateria e temperatura mudas — e o `/hoverboard_base_controller/odom`
  seguia a 9,7 Hz, porque é `open_loop` e integra o comando. **Odometria de roda
  não prova placa viva**; quem prova é o `connected`;
- **`pkill -f compensador_rumo` matou a própria sessão ssh, duas vezes.** O
  colchete do `pgrep` protege contra o `pgrep`, não contra a linha de comando do
  ssh — que continha a string dentro do `setsid ros2 run ...`. Listar com `ps`,
  matar por PID, em dois passos;
- **o NUC caiu junto com o robô no meio da sessão** (17:05 → voltou 17:57 com
  `up 0 min`). Nada se perdeu: CSV vive em `docs/dados/`, não em `/tmp`.

🔴 **PENDÊNCIA QUE ABRE A PRÓXIMA SESSÃO: os 8 CSV de 2,5 m ainda estão no
NUC.** Ele desligou antes do `scp`. Estão em
`~/Controle_robo_livox/docs/dados/2026-08-11-estimador/` (não rastreados pelo
git, então `git reset --hard` não os toca — mas **`git clean -fd` apaga**).
Puxar ANTES de qualquer deploy. Os números já estão neste diário e no
`ambiente.txt`; o que falta é o dado cru para o artigo.

### 11-08 (4ª leva) — a navegação começa tirando as duas travas manuais

Sessão de dev, robô desligado, aberta a pedido do dono: *"dá continuidade na
parte de navegação, temos que dar vazão pra isso logo"*. Decisão **019**.
**333 testes verdes** (eram 327).

🔴 **A pré-condição de toda navegação subia quebrada, e ninguém tinha
consertado**: a `localizacao.launch.py` não passava `frame_da_pose` ao
`tf_odom`, então o nó caía no `child_frame_id` do FAST-LIO (`body`, o frame da
IMU, que não existe no URDF), o lookup falhava e ele **se recusava a publicar**
— corretamente. Custo: os quatro servidores do Nav2 não ativam. Aconteceu em
**06-08, 08-10 e 11-08**, e nas duas últimas alguém matou o nó e subiu na mão.

🔴 **E `mapa:=nenhum` era obrigatório no robô e opcional na sintaxe.** Esquecer
sobe o mapa da pista simulada no robô real — parede onde não há nada — e desde
a 014 isso se mistura com marcação real do Livox. A decisão 015 tinha criado a
opção e parado aí.

➡️ **O padrão vale mais que os dois casos**: o valor perigoso era o default e o
seguro exigia digitação. Agora os dois defaults seguem o `sim`, e quem quiser o
caso perigoso passa o argumento. O `rviz` foi junto (o NUC não tem tela).

🔧 **O ERRO DE TESTE DESTA LEVA, e ele é do mesmo tipo que a 017 pegou.** A
primeira versão do teste de resolução **passou com o condicional invertido na
launch**: ela montava a expressão dentro do próprio teste para conferir o
sentido do `if`, isto é, testava uma cópia. Só percebi porque rodei a mutação —
inverter os ramos na launch e ver se a suíte reclama. Não reclamou.

A versão que ficou lê o `default_value` **do arquivo** (via AST,
`ast.get_source_segment`) e resolve com um `LaunchContext` de verdade. Com ela a
mesma mutação falha. **Teste que reconstrói o alvo não testa o alvo** — é o
parente exato do buraco da 017, onde todos os testes conferiam que os
consumidores concordavam entre si e nenhum perguntava quem publicava.

⏳ **Nada disto foi ao robô.** O que a próxima sessão confirma é barato e cabe
no pré-voo: `ros2 launch robot_base base.launch.py` sozinho tem de deixar a TF
`odom → base_link` de pé, e `ros2 launch robot_motion pilha.launch.py` sem
argumento nenhum tem de subir **sem** `map_server`.

## 2026-08-12 — O perfil do robô real era anterior à bancada que o mediu

Sessão de dev, robô desligado, segunda leva de navegação. Decisão **020**.
**337 testes verdes** (eram 333), quatro novos verificados por mutação.

### Como isto apareceu

Não foi procurando. Abri a leva de navegação para escolher o próximo degrau
depois da 019 e fui ler a pilha inteira antes de propor — `pilha.launch.py`,
`path_follower.py`, `heading_controller.py`, as leis e os YAML. O
`config/movimentacao.yaml` abria assim:

```
# ⚠️ NENHUM DESTES NÚMEROS FOI MEDIDO NESTE ROBÔ AINDA.
zona_morta: 0.15
```

E o `docs/MODELO_ROBO2.md` mediu essa zona morta em **07-31**: 0,0178 m/s de
frente, 0,0148 de ré. O arquivo passou doze dias declarando não medido o que já
estava medido. A `bitola` da mesma leva foi propagada — por causa do defeito de
29-07, que doeu — e as outras duas ficaram para trás em silêncio.

⚠️ **`movimentacao.yaml` não é citado em nenhum documento do repo.** Nem decisão,
nem diário, nem roteiro. Um arquivo que ninguém referencia é um arquivo que
ninguém revisita.

### O que o número errado custava — e a parte que eu não esperava

A conta óbvia: com 0,15 o pivô exigiria 1,48 rad/s contra teto de 1,00, e o nó
anunciava `pivô INDISPONÍVEL` em toda subida. Isso já é ruim, mas é visível.

A parte cara é a segunda, e ela precisou do fonte do driver para fechar:

```cpp
double mx = fmax(|set_speed[0]|, |set_speed[1]|);
if (deadband_enable && mx > 1.0 && mx < deadband_speed) {
    double k = deadband_speed / mx;   set_speed[0] *= k;  set_speed[1] *= k;
}
```

Escalar as **duas juntas** preserva a razão entre as rodas e destrói o módulo.
Como a razão é o que define o raio do arco: **`cmd_vel` escolhe o RAIO; a
velocidade quem escolhe é a placa.** As três corridas cruas de ontem confirmam
com `cmd_v = 0,250`: 0,305 · 0,292 · 0,298 m/s realizados.

Então a "saída" da lei da zona morta — acelerar para tirar a roda de dentro da
banda — **não acelera nada** (o patamar manda) e **muda a razão**, que é a única
grandeza obedecida. Passando pares pela lei do próprio repo:

```
pedido (v · wz)   R pedido    com 0,15            com 0,0178
(0,10 · 0,30)      0,333 m    (0,240·0,30) 0,802   (0,108·0,30) 0,361
(0,15 · 0,50)      0,300 m    (0,268·0,50) 0,535   (0,150·0,50) 0,300
```

A primeira linha é uma corrida de 07-31 que foi ao chão: o robô entregou raio
0,333 m para o pedido de 0,333. A lei mandava 0,802 m para ele.

### O erro de leitura que o dono corrigiu, e ele foi meu

Escrevi a primeira explicação enterrada em conta e ela deu a entender que **o
robô não pivota**. O dono me parou: *"Ele tem sim pivô, aonde que essas
informações estão?? pq ta errado. nós mesmos já fizemos inúmeros testes dele
fazendo pivô. De verdade eu não entendi nada do que vc escreveu aí em cima."*

Ele estava certo nas duas coisas. A máquina pivota — e eu nunca duvidei disso,
era exatamente o meu argumento: **o software é que achava que ela não pivota**.
Mas escrevi de um jeito que só se entende relendo três vezes, e num assunto onde
ele tem a experiência de campo e eu tenho só o repo. Refeito em três blocos
curtos (onde está a informação errada · o que ela diz · por que isso vira
"indisponível"), a conversa andou em uma mensagem.

➡️ **Lição, e ela é de método, não de estilo**: quando a conclusão contraria o
que o dono viu com os próprios olhos, a explicação tem de começar concordando com
o que ele viu. Eu comecei pela aritmética e a aritmética parecia estar discutindo
com a máquina.

E a resposta dele à correção fecha o diagnóstico melhor do que eu: *"achei que
isso já tinha sido feito."* Era exatamente esse o defeito — todo mundo achava.

### A fresta que deixou os arquivos andarem separados

`path_follower.py` declarava `v_piso: 0.335` com o comentário *"TEM QUE BATER com
o que a movimentação calcula: zona_morta + wz_max·bitola/2 + margem"*. A conta
estava certa e o comentário também. **Só que era comentário.** Nenhum teste
conferia, e os dois arquivos envelheceram juntos sem sintoma.

Os quatro testes novos, e três deles fecham buracos e não funcionalidade:

1. o `v_piso` do seguidor é LIDO do `path_follower.py` (por AST) e conferido
   contra a fórmula com os números LIDOS do `movimentacao.yaml`;
2. o pivô existe com o perfil do robô;
3. o par de 07-31 sai da lei com o raio que a máquina mediu;
4. `deadband_enable` está `true` no `robo2.urdf.xacro` — o acoplamento. Se
   alguém desligar a compensação, a zona morta real (0,25–0,50) volta e o piso
   de 0,0178 fica perigoso. O teste cai de propósito.

Mutação nos dois sentidos (voltar `zona_morta` para 0,15; desligar
`deadband_enable`) derruba exatamente os testes esperados: 3 e 1.

🔧 **O teste que previu a própria mudança.** O
`test_a_taxa_minima_implicita_tem_folga_contra_o_piso_de_linear` dizia, escrito
em 05-08: *"Se a zona morta medida na bancada derrubar muito o piso, este par de
números volta à mesa."* Voltou — a folga do gatilho de "emperrado" caiu de 10×
para 6,1×. Ainda passa. Tirei o literal `0.15 + 1.0*0.270/2 + 0.05` de lá e o
piso passou a ser lido do arquivo do robô: copiado, ele mentiria na próxima vez
em vez de derrubar o teste.

### O que fica aberto, e não deve ser lido como resolvido

🔵 **A velocidade continua não sendo comandável.** Toda a lei de velocidade do
seguidor (`velocidade_de_seguimento`: frear na curva, frear perto do objetivo) é
**inerte neste robô** — ele percorre qualquer arco a ~0,30 m/s e chega no ponto
nessa velocidade. Nada nesta leva mexeu nisso.

🔵 **O modelo certo do limiar é uma RAZÃO, não um valor absoluto.** Com a
compensação ligada, a roda de dentro cai no limiar do firmware quando
`interna/externa` fica pequeno demais — condição de raio, não de velocidade. Em
07-31 o pedido `(0,10 · 0,30)` tinha razão comandada 0,42 e o encoder leu 0,22
numa das corridas: a roda de dentro ficou aquém. É lei nova, não parâmetro; fica
como a próxima pergunta desta trilha.

🔵 **`a_dec: 0.3` contra ~3,05 medidos.** Mesmo arquivo, mesma origem, outra
pergunta — mexer na frenagem de rumo mexe no S que só assentou em 11-08. Fica
como escolha anotada no arquivo, não como esquecimento, e vai para leva própria
com corrida de controle.

⏳ **Nada foi ao robô.** A confirmação cabe no pré-voo e não precisa de corrida:
a subida do `heading_controller` tem de dizer `pivô DISPONÍVEL acima de
0,13 rad/s` em vez do `INDISPONÍVEL` de hoje.

🔧 **Dívida de ferramenta vista de novo (anterior a esta leva)**: `test_lei_de_rumo`,
`test_lei_de_seguimento`, `test_navegacao_ponto` e agora os testes novos só
importam `robot_motion.*` quando a suíte roda **por pacote** — rodar um arquivo
sozinho dá `ModuleNotFoundError`. É sorte de ordem de coleta, não robustez. Não
consertei nesta leva de propósito (é plumbing e a mudança do dia é de uma linha),
mas fica registrado: o protocolo é `python3 -m pytest ros2_packages/robot_motion`,
nunca por arquivo.

### 12-08 (2ª leva) — o instrumento que faltava para o robô andar sozinho

O dono perguntou quanto falta para começar os testes no robô, e lembrou das
camadas de segurança. Fui levantar, e a resposta é curta: **falta pouco, e o
pouco que falta não é o Nav2.**

Está de pé no robô (visto na máquina, não no Gazebo): base com a TF fechada
sozinha desde a 019, quatro servidores do Nav2 ativos, percepção marcando
(138 e 504 células letais), robô andando reto, pré-voo 20/20.

Nunca aconteceu: **o robô receber um objetivo e ir**. Cada elo da corrente foi
visto de pé separado; a corrente inteira, com o robô andando, não.

E as camadas de segurança, no placar honesto: o `twist_mux` está provado sem
robô; o reflexo está configurado e desde a 017 consome a nuvem certa, mas
**nunca foi visto parando o robô**; e o homem-morto **não publicou nada** em
06-08 — 44 s, zero amostras. Metade dele já foi consertada em 11-08 (o
`bin/robot-key` morria no `set -u` antes de o teleop existir) e o nó ganhou três
contadores no `rosout` que separam "não lê a tecla" de "lê e não publica" de
"publica e ninguém escuta". Diagnóstico de cinco minutos de bancada.

🔴 **O que faltava mesmo era instrumento.** Nada no repo manda um objetivo para
o robô real e grava a corrida — o `corrida_gazebo.py` sobe o Gazebo e não serve.
Sem isso os experimentos de navegação virariam "o dono olha e relata", que é
justamente o que este projeto não faz.

**`tools/banco/corrida_nav.py`** (ROS) + **`tools/banco/leitura_nav.py`** (puro,
com teste) — a mesma separação do `nuvem_pontos.py`/`nuvem.py`. Grava a corrente
inteira a 20 Hz e julga:

```
/plan                     planejou? replanejou quantas vezes?
/auto_vel_raw             o que o seguidor PEDIU
/auto_vel                 o que o REFLEXO deixou passar
/compensador_rumo/cmd_vel o que o MUX entregou
/key_vel                  o humano meteu a mão? -> corrida MISTA
/Odometry                 a pose aguentou 10 Hz ANDANDO?
```

⚠️ **As duas pontas do reflexo são gravadas porque parar por reflexo e parar por
ter chegado se parecem de fora.** Só `raw` não-nulo com `saída` nula separa as
duas — e essa é a única evidência de que o freio agiu. Tem teste garantindo que
robô parado por ter chegado **não** conta como freada.

🛡️ Manda o objetivo pela **ação** `navigate_to_pose` e não por `/goal_pose`, só
para poder **cancelar** ao sair: instrumento morto com objetivo de pé deixa o
robô tentando sozinho. O cancelamento não é freio — quem freia é o teclado.

**Sete testes novos** (77 em `tools/`, eram 70), três verificados por mutação: o
reflexo deixa de exigir que a autonomia tenha pedido; o caminho passa a somar o
salto do LIO; o pior intervalo de pose vira o melhor. Os três derrubam o teste
esperado.

🔵 **A pergunta do CPU virou linha medida em vez de bloqueio.** Em 11-08 o
`nuvem_pontos` foi morto durante as corridas (91% de um core convertendo 11 mil
pontos em Python) e a taxa do `/Odometry` foi conferida com o robô **parado**. O
dono decidiu que na navegação ele fica vivo — então o instrumento mede o pior
intervalo de pose **durante a corrida**, e é isso que responde. Se engasgar, o
driver do Livox sabe publicar `PointCloud2` em C++ (`xfer_format = 0`), o que
apagaria a ponte Python; fica arquivado como saída, não como trabalho agendado.

📋 **`docs/ROTEIRO_NAVEGACAO_NO_ROBO.md`** — a sessão inteira, em ordem de risco
crescente: homem-morto → ff do dia → objetivo em espaço livre → objetivo com
caixa. **O robô só anda sozinho depois que o freio de mão estiver provado.** O
roteiro traz também a confirmação de uma linha da 020 (`grep -i "pivô"` no log
da pilha tem de dizer `DISPONÍVEL acima de 0,13 rad/s`) e o resgate dos 8 CSV de
11-08 que ainda estão no NUC, antes de qualquer `git clean`.

🔧 **Escrevi o comando errado na primeira versão do roteiro** — mandei o
`medir.py` rodar as corridas, e ele é LEITOR de CSV; quem anda é o `ensaio.py`.
Peguei conferindo cada comando contra o `--help` real antes de fechar. Roteiro
com comando errado queima bancada com a bateria correndo, e é o tipo de erro que
só aparece na hora em que custa caro.

### 12-08 (3ª leva) — a localização fecha, e a NAVEGAÇÃO nunca andou

Sessão de dev sozinho, a pedido do dono ("ataca o pivô agora"). O que era para
ser um conserto de pivô virou um diagnóstico de fundo, e o resultado honesto é:
**não entreguei o robô andando.**

#### O que PASSOU, e é o achado bom do dia

A localização contra mapa fecha ponta a ponta, no mapa do prédio, no Gazebo:

```
scan × mapa   360 feixes válidos, 0 fora do mapa
              100% dentro de 0,15 m, erro mediano 0,050 m — UMA célula
              o mesmo número com --pose odom e --pose amcl
AMCL          active, map→odom com correção nula (a pose simulada é verdadeira)
```

Isso valida o `origin` e a inversão vertical do conversor de mundo, os cortes da
fatia 2D (021) e o alinhamento dos frames. Erro em qualquer um deles seria de
metros, não de uma célula.

#### O que NÃO passou, e a caçada até achar

Objetivo de 13 m no mapa do prédio: o robô andou 0,59 m em 128 s. Quatro
hipóteses caíram, cada uma com evidência, e vale registrar porque cada queda
economiza a próxima sessão:

1. 🔴 **"a corrente de comando quebrou"** — caiu: `mux_wz` recebeu o comando. A
   corrente entrega;
2. 🔴 **"o progress checker do Nav2 abortou"** — caiu: `movement_time_allowance`
   já está em 30 s, e o comentário no `nav2.yaml` já antecipava esse risco;
3. 🔴 **"o alvo não é alcançável"** — caiu: componente conexa de 161 m² contém
   os dois pontos, e o `plano.py` planejou 285 pontos até lá;
4. 🔴 **"o Livox está marcando obstáculo fantasma no costmap global"** — caiu:
   `percepcao.py` deu **0 células letais onde o mapa diz livre**.

O log deu a causa PRÓXIMA numa linha: `GridBased plugin failed to plan ...
"Could not generate path"`. O planejador falhou ao REPLANEJAR, o
`ComputePathToPose` abortou, a `PipelineSequence` caiu, o `FollowPath` foi
halted e o BT abortou em 9,7 s. O congelamento de 118 s que eu gravei depois era
cadáver.

⚠️ E o planejamento neste mapa é **marginal**: planejar de `(0,18 · −0,68)`
funciona e de `(0,10 · −0,75)` não — 15 cm ao lado, ambos com 1,5 m de folga. A
mediana de folga das células livres é **0,35 m** contra um `robot_radius` de
**0,32**: o corredor mapeado é pouco mais largo que o robô. Com
`inflation_radius` 0,50 → 0/8 pontos de partida planejam; com 0,20 → 4/8.

#### A causa de FUNDO, que só apareceu voltando para a pista

Rodei o mesmo objetivo na **pista** — o mundo onde tudo já foi aprovado — com
AMCL e, como controle, com a TF fixa. Os dois falharam:

```
                    raw_v não-nulo    andou      dist ao alvo
pista + amcl         0 / 1500        0,11 m     2,20 -> 2,30 m
pista + TF fixa      1 / 1500        0,20 m     2,20 -> 2,34 m
```

🔴 **O seguidor praticamente NUNCA pede velocidade linear** — 1 amostra em 1500.
Não é o AMCL (o controle falha igual), não é o mapa, não é o Nav2.

O `rosout` mostra o ciclo: `PIVÔ: +46° de erro — parando para virar no eixo`,
depois `sem progresso`, e `pivô fechado` **15 s depois**. Onze mensagens de pivô
numa corrida de 75 s. O robô entra em pivô, fica lá com `v = 0`, fecha, anda
alguns centímetros, o erro de rumo passa dos 15° de novo (`limiar_pivo` 0,26
rad) e ele repivota. Com a cenoura a 0,37 m, erro acima de 15° é o estado
NORMAL, não a exceção.

➡️ **A hipótese para a próxima leva**: `lookahead` curto (0,37 m) e
`limiar_pivo` baixo (15°) se realimentam — o seguidor pede rumo que só o pivô
entrega, e o pivô proíbe avançar. É reproduzível na planta de brinquedo, **sem
Gazebo e sem robô**, e é lá que tem de ser reproduzida antes de qualquer
conserto.

#### O que isto muda no entendimento do projeto

⚠️ **A navegação ponto a ponto nunca foi vista andando — nem no simulador.** O
que as decisões 008/014/015 mediram foi **planejamento** (`plano.py` planeja sem
mover) e **percepção** (`percepcao.py`). O elo "o robô percorre o plano" estava
suposto, e o `corrida_nav.py` (12-08) é o primeiro instrumento que olha para ele.

🔧 **Erro meu de bancada, de novo**: subi duas pilhas simultâneas na primeira
tentativa e passei um tempo interpretando `Detected jump back in time` e um robô
que "andava sozinho" — eram dois Gazebos disputando o `/clock`. É a armadilha
que o próprio ESTADO documenta desde 07-08. `ps`, sempre.

🔧 **E o instrumento ganhou o que faltava**: `corrida_nav.py` agora grava
`rumo_alvo` e `erro_rumo`. Sem eles, "robô apontado para o lado errado" tinha
duas explicações e nenhuma prova — foi exatamente o que me travou por uma hora.

### 12-08 (4ª leva) — o culpado é o SEGUIDOR, e o pivô era inocente

Com o dono na frente, subi o Gazebo e ele viu o robô girar de um lado para o
outro. Duas coisas saíram disso, e a primeira é de método:

🔧 **`ros2 param set` não chega nos nossos nós.** Ajustei `limiar_pivo` ao vivo,
anunciei o ajuste, e não mudou nada — `heading_controller` copia os parâmetros
para `self.par` na subida e nunca mais os relê. O robô continuou com 15°. Já
estava listado como armadilha no roteiro e caí nela na frente do dono. Vale para
`path_follower` também; parâmetro de costmap do Nav2 esse sim muda ao vivo.

➡️ **E o custo real disso**: chamei o dono para ver uma correção que nunca tinha
sido aplicada. Teste ao vivo só depois de confirmar, por leitura do parâmetro,
que o que eu mudei está de pé.

🔵 **O pivô era inocente.** Com `limiar_pivo` de fato em 0,79 rad (YAML +
rebuild), os pivôs caíram de **11 para 2** numa corrida de 90 s — e o robô
continuou parado: `raw_v` não-nulo em **14 de 1800** amostras.

🎯 **E o número que aponta o culpado**: o erro de rumo tem **mediana 0°**. Com o
robô apontado certo e sem pivô em curso, quem decide a velocidade é o SEGUIDOR:

```python
raio = curvatura_adiante(self.plano, i0, janela=la)
v    = velocidade_de_seguimento(dist, raio, v_max, a_lin, wz_max)
```

**Suspeita para a próxima leva**: o plano do Theta* vem com ponto a cada 5 cm e
ziguezague de grade, `curvatura_adiante` devolve raio minúsculo e a velocidade é
cortada para perto de zero. As duas são funções PURAS — se prova sem Gazebo e
sem robô, alimentando-as com o plano real.

⚠️ **O que isto reclassifica**: "o Nav2 está funcionando" é verdade e sempre foi
— ele planeja. O que nunca funcionou é o nosso seguidor percorrer o que ele
planeja, e isso não era regressão de hoje: nunca tinha sido olhado.

## 🔄 2026-08-12 (4ª leva) — O pivô era o culpado, e a régua media o robô desligado

Sessão de dev, sem robô e sem Gazebo. Tudo aqui saiu de releitura dos CSV de
12-08 e de aritmética. Decisão **023**. **388 testes verdes** (eram 376), doze
novos, quatro verificados por mutação.

O dono abriu a sessão dizendo, com todas as letras, que já tinha visto o robô
seguindo o Nav2 no Gazebo e entrando na porta. **Ele estava certo, e a entrada
anterior deste diário estava errada.** Vale escrever qual erro foi, porque ele é
de método e não de máquina.

### O artefato que produziu "o robô nunca percorreu o plano"

A leitura de 12-08 concluiu que o erro de rumo tinha **mediana 0°** e que,
portanto, o culpado era a lei de velocidade do seguidor. A conta que derruba
isso é de duas linhas, em `pista-fixa-a.csv`:

```
amostras de erro_rumo                1494
zeros exatos                          847
amostras depois de o robô congelar    847     (1500 − 653)
```

Batem na unidade. **Todos os zeros vêm do trecho morto**, depois de o seguidor
já ter parado — e `para()` publica `rumo_alvo = rumo atual` de propósito, o que
fabrica erro zero. A mediana estava medindo o robô desligado. Na fase viva,
`|erro| > 15°` em **530 de 964** amostras.

➡️ **Lição, e ela vale para o artigo**: estatística sobre uma corrida inteira
mistura o regime que se quer medir com o rabo em que o sistema já desistiu. A
régua tem de recortar a fase viva ANTES de resumir. É parente da mudança de
protocolo de 10-08 (corrida curta demais aprovava robô oscilando) — lá a régua
era curta, aqui ela era longa demais.

### O que as corridas mostram quando se olha a fase viva

```
                fase viva   giro total   deslocamento   raw_v≠0
pista-fixa-a      32,6 s      1321°         0,20 m       1/1500
pista-limiar45    31,9 s      1260°         0,06 m      14/1800
pista-amcl-a      15,1 s       647°         0,11 m       0/1500
objetivo-a         8,3 s       382°         0,23 m       0/2563
```

Não é "não pede velocidade". É **girar no lugar**: 3,7 voltas para 20 cm.

### A placa não entrega módulo, e é isso o tempo todo

```
pedido 0,10 rad/s  ->  entrega 2,204 rad/s
pedido 1,00 rad/s  ->  entrega 2,204 rad/s        CSV de 12-08: pico 2,152
```

A compensação de zona morta do driver escala as duas rodas pelo mesmo `k` até a
maior vencer o deadband. E depois do corte a placa **segura a saída cheia** por
0,52 s (medido no robô, 04-08), decaindo em rampa: o robô ainda ACELERA depois
de mandarem parar. Varredura pós-corte medida no Gazebo: **93–101°** (n=5),
contra 25–32° que a lei previa.

**Os 28 disparos de pivô das quatro corridas tinham erro entre 35° e 81°.**
Nenhum era executável. O ciclo-limite era obrigatório.

### O conserto óbvio não era conserto, e o argumento é estrutural

Baixar `pivo_a_dec` é o que a própria lei sanciona (*"errar para baixo é de
graça"*). Varri de 0,60 a 0,05, alvos de 20° a 180°: **o acerto vira sorteio por
ângulo, não tendência.** A razão:

> a sobra **prevista** é `wz²/(2·a_dec)`, parábola no `wz` do corte;
> a sobra **real** é a retenção da placa, e ela **não depende do `wz` do corte**.
> Parábola não casa com constante em valor nenhum de `a_dec`.

### E a planta de brinquedo tinha o mesmo ponto cego do simulador

Exatamente o achado de 06-08 repetido: lá a planta do rumo modelava 0,26 s de
atraso contra os 0,94 s medidos. Aqui ela **congelava** o `wz` por 0,2 s depois
do corte, em vez de segurar a saída cheia por 0,52 s como a placa faz. Corrigida,
**10 dos testes do pivô caem na hora** — e eles vinham passando desde 05-08
contra um atuador que não existe.

Os testes ficaram separados em duas seções, e a separação é o produto: uma roda
contra `Planta(atraso_desliga=0.0)`, o atuador que a lei SUPÕE, e lá a aritmética
do corte está certa; a outra roda contra a placa de verdade, e lá a manobra não
fecha em ângulo nenhum. É isso que permite dizer QUAL das duas quebrou.

### A decisão

O pivô sai do caminho do seguidor (`limiar_pivo` acima de π, `aponta_no_fim`
false, e o caso `parado` sai do `precisa_pivo`). Quem responde por rumo é a lei
contínua da 005, que contra a MESMA placa assenta em **0,5–0,6° de 20° a 180°**,
andando 97–99% do tempo.

> A compensação escala as duas rodas juntas: preserva a RAZÃO, destrói o MÓDULO.
> **Arco é razão** — 0,515 m pedido, 0,515 m entregue. **Pivô é módulo.**

### Quando quebrou, por git

```
9f00854  05-08  batidas: 2509 -> 0 invasões, passa no meio da porta
...
6aa347a  05-08  simulador: as duas pontas da placa      <- a retenção entra
```

A corrida boa é **ancestral** da que quebrou. E a aceitação de `6aa347a` já
registrava *"O pivô, n=3 por ponto — **NÃO passou**"*. O defeito estava escrito
no diário desde 05-08. **O que faltou foi ligá-lo à navegação** — entre 05-08 e
12-08 a corrente inteira não voltou a rodar ponta a ponta, e um resultado
negativo isolado não viaja sozinho até o lugar onde ele importa.

⚠️ **Nada disto foi ao Gazebo nem ao robô.** A previsão que a próxima corrida
testa está na 023 e é uma só: `raw_v` não-nulo em mais de 80% das amostras, com
a distância ao alvo caindo de forma monótona.

## 🔙 2026-08-12 (5ª leva) — O robô anda de novo, e o reflexo aparece pela primeira vez

Primeira sessão com Gazebo desde 12-08 de manhã. **391 testes verdes** (eram
388). Decisão **024**.

### A 023 passou na máquina

Alvo (2,0 · 7,2), o mesmo das corridas travadas:

```
                   12-08 (manhã)        agora
raw_v não-nulo      1 / 1500           176 / 191   (92,1%)
distância           2,20 -> 2,34 m     2,20 -> 0,07 m
giro total          1321°              141°
chegou              nunca              9,5 s
```

A previsão da 023 pedia >80% de `raw_v` não-nulo e distância monótona: saiu
92,1% e o pior recuo contra o melhor já visto foi 0,038 m. **Passou nas duas
pontas**, e a tortuosidade ficou em 1,09.

### E aí a porta, que é onde a coisa fica interessante

Alvo (6,0 · 1,5), atravessando o vão de 0,90 m. Ele andou 3,31 m e parou:

```
[collision_monitor]: Robot to stop due to PolygonStop polygon
```

🟢 **Primeira vez que o reflexo é visto parando o robô.** O `ESTADO` o listava
como *"configurado, NUNCA visto parando o robô"* — três sessões de robô e duas
de simulador com ele de pé e nunca uma evidência. O canto do polígono alcançava
(4,07 · 1,97) contra uma ombreira que vai até 2,05. Palavra do dono: *"parou
antes de bater, ótimo (...) ele não bateu, que é o principal"*.

### O travamento, e o defeito de ORDEM que ele revelou

Parado ali, o planner recusou (`Start occupied`), o `bt_navigator` abortou, o
plano venceu e o seguidor parou para sempre — 87 s de pose imóvel.

O seguidor **sempre teve** recuperação (a ré da 009). Ela era inalcançável por
construção: a guarda de plano velho dava `return` antes da checagem de
progresso, e o plano vence justamente quando o robô trava.

➡️ **Lição de método**: nenhum teste de valor pegaria isso — todos os números
estavam certos. É defeito de **ordem de linhas**, e a única régua possível é
ler a ordem. Os testes desta leva leem por AST.

⚠️ **E o primeiro deles nasceu errado, do mesmo jeito que o da 019.** Ele
procurava a chamada `passo_de_re` e comparava com `para()` — mas `passo_de_re`
é chamado em DOIS lugares e `para()` em três, e o teste comparava o par errado.
**Sobreviveu à mutação que existia para pegar.** A versão final procura o nó
`If` do despacho `estado == 're'` e o `para('plano velho')` pelo argumento.
Terceira vez que este projeto escreve "teste que casa com a coisa errada não
testa" — e a terceira vez que só a mutação avisou.

### O elo seguinte, e ele já está medido

A ré religada disparou e **não moveu o robô**: `fim da ré: recuou 0.00 m em
8.0 s`, três vezes. O CSV dá o número redondo:

```
amostras com ré pedida (raw_v < 0)     831
...que passaram pelo reflexo             0      (100% vetadas)
```

**O `PolygonStop` é cego para direção.** Polígono estático de −0,28 a +0,49 m
com `action_type: stop`: ponto lá dentro zera QUALQUER comando. O mesmo reflexo
que salvou o robô de bater é o que o impede de se afastar.

Fica anotado como próximo elo, e ele é do **reflexo**, não do seguidor. Não
mexi hoje: o freio de mão é a peça que menos merece conserto no chute, e o
comportamento de parar diante do obstáculo é para preservar inteiro.

### Duas dívidas que a sessão abriu, sem conserto

- **Ele entrou torto na porta** — 0,16 m fora do centro de um vão de 0,90 m com
  um corpo de 0,63 m (13 cm por lado). Em 05-08 passou *"perfeitamente no
  meio"* e **tinha o pivô** para se esquadrejar. É custo da 023, e o dono já
  decidiu: leva separada, com o `folga.py` de régua.
- **`pior intervalo de /Odometry 0,336 s` com o robô andando** — o instrumento
  delatou. Pode ser carga da minha máquina (Gazebo + RViz + tudo junto) e não
  o robô; não vale conclusão sem repetir.

### Armadilha de ambiente, e ela quase contaminou a medida

Antes da primeira corrida declarei "ambiente limpo" com um `ps` filtrado por
`comm` — e havia **4 `static_transform_publisher` órfãos** de 11:50 a 12:44,
exatamente a janela das corridas da manhã. As corridas de 12-08 rodaram com até
quatro `map→odom` concorrentes. Não muda o diagnóstico do pivô (que se mede em
yaw e comando), mas **muda a régua**: a varredura de processo tem de casar com
a linha de comando inteira, não com o nome curto.

## 🚪 2026-08-12 (6ª leva) — O robô atravessa a porta, e a recuperação aprende a parar

Decisão **025**. **246 testes verdes** no total (`robot_motion` 234). Seis
mutações, seis pegas — duas delas só depois de eu consertar o próprio teste.

### O furo, e por que ele é aceitável

A ré da 024 era vetada pelo reflexo (831/831). O dono apontou a estratégia:
*"o recuo deve ser um furo do bloqueio, ele vê se não tem nada atrás e aí dá a
ré furando o bloqueio todo"*. Canal `unstuck_vel` no mux com prioridade 30 —
acima da autonomia, **abaixo do humano** —, e a ré só sai depois de medir o vão
traseiro em metros num corredor retangular da largura do robô.

⚠️ **Retangular e não cone**, e isso não é preferência: cone traseiro é cego
para a quina, porque o feixe que pega o canto cai fora do ângulo. Teste com o
caso exato — feixe a 145°, fora de ±30°, com `y = 0,34 m` dentro da meia-largura
de 0,35.

### E a primeira versão fabricou uma FUGA

Ele atravessou a porta, mas cobrando 16,41 m para 5,32 m de reta, com 9 rés:
2,50 m → 5,10 m do objetivo, andando de costas em linha reta até o vão traseiro
cair de 3,17 m para 0,31 m. Quem viu foi o dono, na tela: *"ele ativou dnv a ré
mesmo estando reto na porta"*.

`re_parado_s` era 1,5 s e a própria ré dura 1,6–2,8 s. O relógio rearmava antes
de o robô ter chance física de aproveitar a manobra anterior — realimentação
positiva.

➡️ **E aqui está a lição que vale para o artigo**: o gatilho por sintoma da 009
foi projetado supondo que a manobra é instantânea em relação ao relógio que a
dispara. Não é. **Recuperação que demora mais que o próprio detector de
emperramento se auto-alimenta**, e o sintoma não parece um erro de tempo —
parece o robô "decidindo" recuar sem motivo.

Consertos: `re_parado_s` → 4,0 s (acima da manobra mais longa medida) e
`re_max_seguidas` = 2, que **não depende de sintonia**: recuo que não faz o robô
bater a distância que ele já tinha antes da ré não é recuperação.

```
                                     chegou     dist mín   rés
recuperação inalcançável (pré-024)     não       2,49 m      0
ré alcançável, vetada pelo reflexo     não       2,46 m      0
ré furando, sem teto                  65,8 s     0,07 m      9
ré com teto e relógio medido          29,9 s     0,08 m      1
```

Tortuosidade 3,09 → **1,30**. A única ré é exatamente a que o dono aprovou.

### 🔧 Um teste meu nasceu errado, e da forma mais instrutiva

O teste do relógio derivava `re_orcamento_cego / v_piso` = 1,48 s — e por isso
**aprovava os 1,5 s que tinham acabado de produzir a fuga**. A derivação estava
correta como aritmética e era da grandeza errada: o robô não precisa desfazer a
ré inteira (o `reinicia()` põe a marca no ponto pós-recuo), precisa gastar a
manobra mais a inércia da placa. A mutação pegou.

➡️ **Derivação bonita da grandeza errada aprova o defeito.** É a terceira vez
nesta sessão que só a mutação separou "teste que vale" de "teste que passa", e
as três foram testes que eu mesmo tinha acabado de escrever.

## 🪄 2026-08-12 (7ª leva) — O plano passa a ser suavizado, e isso não bastou

Decisão **026**. **405 testes verdes** no total (`robot_motion` 238).

### O critério do dono, e ele é o melhor que esta sessão produziu

Depois de ver o robô atravessar a porta usando a ré, o dono nomeou a coisa
certa: **a ré é band-aid**. E deu o critério:

> *"precisamos fazer agora ele melhorar a navegação para que não vá em direção
> a paredes e obstáculos, para que ele só pare em momentos que sejam surpresas,
> uma pessoa, um obstáculo móvel (...) o que é parado deve ser desviado
> previamente pela navegação"*

Isso é **falsificável e automatizável**, que é o que o torna valioso: reflexo
disparando contra obstáculo que está no MAPA é falha de navegação por
definição, e a régua (`folga.py` contra o mapa + o registro de reflexo do
`corrida_nav.py`) já existe.

### A medida que separa planner de seguidor

```
porta: parede em x=4,0 · vão de y=2,05 a 2,95 · CENTRO 2,50 · corpo 0,63 m

o PLANO do Theta*      cruza em y=2,483   (−0,017 m do centro)  sobra +0,118 m/lado
o CAMINHO REALIZADO    cruza em y=2,401   (−0,099 m do centro)  sobra +0,036 m/lado
```

**O planner não é o culpado.** Ele cruza a 1,7 cm do centro de um vão de 90 cm.
Quem come dois terços da margem é o seguidor.

Mas o plano também não é **seguível**: reamostrado a 0,20 m ele tem 14 viradas
acima de 2°, com **23,0° a 0,46 m da porta** — dentro da mira de 0,37 m do
seguidor, onde a cenoura salta por cima da quina.

### O suavizador, e a bancada que escolheu por medida

Entra o `smoother_server` e, com ele, **a primeira árvore de comportamento
própria do projeto** — porque nenhuma das doze de fábrica do Jazzy chama
`SmoothPath`. A árvore preserva a recuperação ZERO de 29-07.

```
              quina máx (4 corridas)              mediana   folga mín
cru           45,0 · 23,3 · 30,1 · 36,9            33,5°     0,450
simples       19,9 · 22,6 · 22,8 · 26,4            22,7°     0,454
savgol        24,2 · 33,5 · 33,6 · 35,6            33,6°     0,452
suave         NÃO COMPLETOU nas 4 (error_code 504)
```

O `ConstrainedSmoother` (`suave`) era o **favorito a priori** — o único que
olha o costmap — e falhou nas quatro. Eu tinha escrito, antes de rodar, que
"favorito a priori é o que esse banco existe para derrubar". Derrubou.

### 🔴 E o resultado principal é NEGATIVO

```
                       antes do suavizador    com SimpleSmoother
tortuosidade               1,30                   1,31
rés                        1                      1
reflexo                    2× em t=12,0 s         2× em t=12,3 s
erro de trajeto p50        0,174 m                0,128 m
                p90        0,297 m                0,321 m
```

Mediana cai 26%, **p90 e máximo pioram**, comportamento igual. O critério do
dono não foi atingido.

➡️ **A alavanca do lado do Nav2 está quase esgotada.** O plano já cruza a 1,7 cm
do centro e a quina caiu de 33,5° para 22,7°; o robô segue perdendo 10 a 17 cm.
O termo dominante é o SEGUIDOR: a lei é só de rumo, sem termo de desvio
lateral, e o `lookahead` de 0,37 m foi escolhido em 05-08 para um seguidor que
PIVOTAVA.

### 🔧 A bancada mentiu, e do jeito mais perigoso

A primeira versão não mandava `max_smoothing_duration`. O campo chegou ZERO, o
servidor abortou com *"Smoothing time exceeded allowed duration of −0.00"* — e
a bancada imprimiu **os quatro caminhos idênticos** como se fosse medida.

Lida ao pé da letra, aquela tabela dizia *"suavizar não faz diferença"*, e eu
teria descartado o suavizador inteiro com base em nada. Agora ela **recusa
resultado que não completou**.

➡️ **Instrumento que devolve número sem ter medido é pior que instrumento
quebrado**: o quebrado a gente conserta, o mentiroso a gente cita.

### 🔧 E eu travei o Gazebo

Subindo e descendo a pilha muitas vezes, o spawner (`ros_gz_sim create`) ficou
preso em *"Requesting list of world names"* e a TF `map → base_link` nunca
fechou — com cara de defeito do `smoother_server`, que tinha acabado de entrar.
Não era: era sujeita de ambiente minha. Custou uma corrida.

⚠️ Some-se à armadilha da 5ª leva (declarei "ambiente limpo" filtrando `ps` por
`comm` e havia 4 `static_transform_publisher` órfãos). **Duas vezes no mesmo
dia o ambiente sujo produziu diagnóstico falso.** A varredura tem de casar com
a linha de comando inteira, e a limpeza tem de ser verificada, não presumida.

## 🎯 2026-08-12 (8ª leva) — O NAV2 DIRIGIU O ROBÔ REAL E CHEGOU, e o reflexo dispara contra o próprio robô

**Sessão no robô**, primeira ida à máquina com o trabalho das decisões 020–026.
Bateria 41,13 V no começo, placa a **20,8 °C** (robô frio). Commit `308ad68`.
Dados em `docs/dados/2026-08-12-robo-nav2/`.

### 🟢 O RESULTADO: a primeira navegação autônoma deste robô no chão real

Passo 5 do `docs/ROTEIRO_NAV2_NO_ROBO.md`, alvo (2,0 · 0,0) sem mapa:

```
chegada        0,054 m do alvo, em ~8 s          (raio de aceitação 0,25 m)
caminho        3,77 m para 1,96 m de reta        tortuosidade 1,92
replanejou     7x
raw_v          77,6% da fase andando não-nulo    (critério: > 80%)
pose           10,0 Hz, pior intervalo 0,118 s
```

A cadeia inteira funcionou pela primeira vez fora do simulador: `bt_navigator`
→ `planner_server` → `path_follower` → `heading_controller` →
`collision_monitor` → `twist_mux` → `compensador_rumo` → placa. **A previsão da
decisão 023 (pivô fora do caminho) passou no robô real**: o `rosout` anunciou
`pivô por corte FORA DO CAMINHO (limiar_pivo=3.20 rad)` e o robô **andou** em
vez de girar no lugar — era exatamente o modo de falha de 12-08 de manhã.

⚠️ **O 77,6% fica ABAIXO do critério por artefato de medida**: o robô chegou em
8 s e o instrumento só encerrou no teto de 60 s, então 51 s de robô parado
entraram na conta. Medido até a chegada, dá ~97%. **Dívida do `corrida_nav.py`:
encerrar quando entra no raio.** O critério em si passou.

### 🔴 O S DE RUMO É REAL — e é de nariz, não de trajeto

O dono viu a olho ("fez um S bizarro aqui") e o CSV confirma:

```
yaw       +19,5°  ->  −26,0°  ->  +36,6°     amplitude 63°, envoltória crescendo
desvio lateral    máximo 0,17 m em 2 m percorridos
```

**Ele bambeia o nariz muito e o corpo pouco** — foi por isso que chegou apesar
do S. Meio-período ~3,2 s, mais longo que os 2,2–2,4 s do S de 05-08/06-08.

### 🔴 A CAUSA MAIS PROVÁVEL, E ELA ESTÁ MEDIDA: o reflexo enxerga o próprio robô

Durante a corrida o `collision_monitor` **vetou 26 dos 156 comandos (17%)**, em
11 rajadas. Cada veto zera o comando por ~0,1 s **dentro de uma malha que já
tem 0,94 s de tempo morto** — é injeção de perturbação no laço que produz o S.

E ele não precisa de corrida para disparar: **com o robô parado, no meio da
sala, continua disparando** (928 `Robot to stop due to PolygonStop polygon` no
log da sessão, o último 0,4 s antes de eu medir). Contando os pontos da nuvem
que caem dentro do polígono de parada, com o robô imóvel:

```
0 a 2 pontos por quadro, sempre no MESMO lugar:
   x ≈ +0,04 m   y ≈ +0,09 m   z ≈ 0,42–0,47 m (frame base_link)
   raio horizontal 0,10 m do sensor        min_points: 2 -> dispara com 2
```

10 cm ao lado do Mid-360 e na altura dele: **é peça do próprio robô** (suporte,
cabo ou parafuso junto ao sensor). Como oscila entre 1 e 2 pontos, o reflexo
liga e desliga sozinho o tempo todo.

➡️ **É a mesma família do defeito que a decisão 017 já tinha pego** — lá o
ponto `(0,0,0)` do Mid-360 era o próprio robô e foi descartado. Tratou-se UM
ponto; sobrou o vizinho. **A melhoria que vamos tentar**: o `nuvem_pontos`
descarta pontos dentro de um RAIO do sensor (~0,15 m), não só a origem exata.
A alternativa barata (subir `min_points` de 2 para 6) foi descartada pelo dono
e por mim: esconde o sintoma e cega o reflexo para obstáculo pequeno de verdade.

⚠️ **Um reflexo que dispara sempre é um reflexo que não quer dizer nada**, e o
critério que o dono cobra no passo 7 é justamente "o reflexo só dispara por
surpresa". Rodar o teste da parede com isto ligado gastaria bateria medindo
ruído — por isso a sessão parou aqui para consertar.

### O que mais ficou provado nesta ida

- **A decisão 019 valeu no robô real**: a `localizacao.launch.py` subiu o
  `tf_odom` com `frame_da_pose:=livox_frame` sozinha (`primeira TF publicada
  (pose vinha de 'livox_frame', composta com o URDF)`), sem ninguém matar e
  subir na mão como em 08-10 e 11-08. E a 018 segue de pé: `odom` em
  **z = −0,060 m** contra os −0,477 de 10-08;
- **pré-voo 20/20** (o único ❌ é o falso positivo conhecido: a própria linha de
  comando do `ssh` contendo `robot_motion` conta como segunda pilha);
- **`/scan` real: 9,998 Hz, pior intervalo 0,135 s** — muito abaixo do limiar
  `re_scan_velho_s = 0,8 s`. **Pergunta 2 da sessão respondida**: a ré
  não-cega tem medida fresca de sobra e não vai se recusar a recuar. O real é
  melhor que o simulado (7,7 Hz, máx 0,513 s);
- **vão traseiro contra a trena: 0,858 m** (mediana de 58 quadros, espalho
  0,831–0,867), confirmado pelo dono. ⚠️ **A segunda metade do passo 4b ficou
  sem fazer**: a caixa encostada atrás, que tem de dar 0,00, inclusive na
  quina. É o modo de falha que importa, e segue em aberto;
- **o freio de mão obedece**: o robô andou pelo teclado e parou. ⚠️ Mas o
  homem-morto **não foi exercitado**: o `[A] = 0,008 s` medido foi o zero que o
  teleop publica ao MORRER (o dono fechou o `robot-key`), não a temporização de
  0,4 s da tecla solta.

### 🔧 Armadilhas e dívidas desta sessão

- 🔴 **O `homem_morto.py` mede `[C]` com régua de mentira**: ele lê
  `/hoverboard_base_controller/odom`, e o controlador está com
  **`open_loop: true`** — essa odometria é calculada do COMANDO, não do
  encoder. Ela zera junto com o comando por construção, e a retenção de 0,52 s
  da placa fica invisível (mediu 0,091 s). O robô TEM realimentação de verdade
  em `/hoverboard/left_wheel/velocity`. Conserto pequeno, não feito ainda;
- 🔴 **O passo 3 do roteiro, como está escrito, dirige o robô**: ele manda
  rodar o `prova_mux.py` com a pilha de pé, e o script publica de verdade em
  `/key_vel` (0,90) e `/auto_vel` (0,10) por ~4,5 s. Com o mux real no meio,
  isso desce até a placa — no chão, ~3 m de corrida. Pulado nesta sessão;
- ⚠️ **Teleop vivo TRAVA a autonomia**: o `robot-key` publica zero a 20 Hz em
  prioridade 90, então enquanto ele estiver aberto o Nav2 não move o robô, com
  cara de "a navegação não dirige". Fechar antes de qualquer corrida autônoma;
- ⚠️ **A confirmação barata do roteiro (`grep limiar_pivo`) procura no lugar
  errado**: só o `movimentacao_sim.yaml` declara o parâmetro. No robô real quem
  responde é o default do nó (3,20) — que é o caso seguro, regra da 019. Quem
  prova é o `rosout`, não o `grep`;
- ⚠️ **O `twist_mux.yaml` se contradiz**: o cabeçalho ainda diz que a entrada
  `unstuck_vel` "não existe AINDA", e ela está declarada 40 linhas abaixo
  (prioridade 30, decisão 025);
- ⚠️ **Assimetria de roda grande na arrancada do teleop**: encoders acusaram
  esquerda 3,23 rad contra direita 6,65 rad. É muito mais que o arco conhecido
  (raio 1,22 m). Não investigado — anotado para a próxima leva.

## 🔩 2026-08-12 (9ª leva) — A peça saiu do robô, e o filtro do corpo entra por escrito

Sessão curta, **robô desligado**, logo depois da 8ª leva. Decisão **027**.

🔧 **O dono arrancou a estrutura que havia em volta do Mid-360** ao ver a
medida dos pontos dentro do polígono de parada. O sintoma de hoje deve ter ido
junto — e é justamente por isso que o registro importa: **o defeito de software
continua lá**, esperando o próximo suporte ou cabo montado perto do lidar.

🟢 **Entrou o `raio_cego` (default 0,15 m)**: o `nuvem_pontos` passa a descartar
todo ponto a menos disso do EIXO do sensor, e não só a origem exata. Cilindro e
não esfera — o corpo fica ABAIXO do lidar, e esfera deixaria passar exatamente a
coluna que atrapalha. O nó anuncia o valor no `rosout` na subida.

⚠️ **É reincidência da 017**, e essa é a lição de método da leva: lá o ponto
`(0,0,0)` foi reconhecido como sendo "o próprio robô" e descartado — tratou-se
UM ponto, sem generalizar para "o sensor enxerga o corpo em que está montado".
O vizinho a 10 cm passou reto por doze dias e só apareceu quando dirigiu o robô.

⏳ **A previsão ficou de graça, e a ORDEM dela é o que vale**: a peça saiu
DEPOIS da medida e ANTES do conserto, então dá para separar hardware de
software. Primeira corrida com `raio_cego:=0.0` (comportamento velho): se o
`PolygonStop` calar com o robô parado, a causa está confirmada **por
intervenção**. Se continuar disparando, a peça não era a culpada e o suspeito
seguinte é a faixa de altura pegando o chão. Só depois disso o default de 0,15.
**Não misturar os dois num deploy só** — foi esse o erro de 11-08 com o
estimador do ff, que deixou a previsão separadora sem teste possível.

**75 testes verdes no `robot_base`** (eram 70), os cinco novos verificados por
mutação nas duas direções.

## 🧭 2026-08-12 (10ª leva) — O S do Nav2 não é do planejador, e a conta fecha em 18°

Robô ligado, três corridas do passo 5 e um teste de planejamento **sem mover**.
Dados em `docs/dados/2026-08-12-robo-nav2/`. Bateria 40,81 V, placa 23,7 °C.

🟢 **A 027 passou por intervenção.** Mesmo código, o dono arrancou a peça que
havia em volta do sensor: **0 pontos no polígono em 35 quadros e 0 disparos**,
contra 0–2 pontos e 928 disparos antes. `collision_monitor` `active` e nuvem a
10,2 Hz nos dois lados — não é pilha morta dando zero.

```
                          vetos do reflexo   yaw     desvio lateral
antes (com a peça)          26  (16,7%)     62,8°       0,168 m
depois (peça fora + 027)     2  ( 1,3%)     38,4°       0,103 m
```

**O reflexo era 39% do S.** O resto não é dele.

🔵 **E não é do laço de rumo: a REFERÊNCIA é que oscila.**

```
                          referência (rumo_alvo)   medido (yaw)
olhar 0,30 + ff velho             38,8°               38,4°
olhar 0,30 + ff ontem             30,6°               32,9°
olhar 0,60 + ff ontem             38,1°               42,6°
```

As amplitudes são a MESMA coisa: o compensador obedece com precisão. Por isso o
S "voltou" com o Nav2 e não existia em 11-08 — lá a referência era uma reta fixa
(`ensaio.py`, wz=0) e ele deu 6–10°. **O S mudou de dono.**

🔵 **HIPÓTESE DO DONO TESTADA E RETIRADA: não é o planejador.** Com o robô
parado, `plano.py` pediu caminho pelo `compute_path_to_pose`:

```
alvo 3,0   63 pontos, 3,10 m para 3,10 m de reta   1,00x
alvo 2,5   40 pontos, 1,95 / 1,95                  1,00x
alvo 1,0   16 pontos, 0,83 / 0,82                  1,01x
alvo 4,0   VAZIO — limite da janela de 20 m / parede
```

**Todo plano sai reto.** O S nasce entre o plano e o robô.

🔴 **A CONTA QUE FECHA, e ela é geométrica**: o seguidor mira 0,30 m à frente e
o robô fica com ~0,10 m de desvio lateral. `atan(0,10/0,30) = 18°` — que é
exatamente a amplitude de referência medida (±19°). Desvio lateral pequeno vira
ordem de virada enorme; a placa entrega mais giro do que foi pedido (023: ela
escala o comando inteiro por `k = 100/mx`); o robô passa da linha e a ordem
inverte. **Ciclo que se alimenta.**

⚠️ **E é por isso que mirar mais longe PIOROU** (previsão falsificada, `lookahead
0,30 → 0,60`): com 0,60 m o desvio lateral já era 0,18 m, e
`atan(0,18/0,60) = 17°` — o mesmo ângulo. **O ciclo se reajusta**, o knob não é
alavanca. O `lookahead_piso` virou argumento de launch nesta leva e fica no
default 0,30.

⚠️ **Ressalva de método**: n=1 por condição, e este robô já mostrou dispersão
grande entre corridas idênticas (06-08: faixa contra faixa, nunca n=1 contra
n=1). Nada aqui autoriza ranquear 30,6° contra 38,1° como diferença real — o
que autoriza conclusão é a IGUALDADE entre referência e yaw, que apareceu nas
três, e o plano reto medido com o robô parado.

⏳ **A próxima hipótese, ainda não testada**: a autoridade de giro. `wz_max` do
`heading_controller` está em 1,0 rad/s e a placa transforma qualquer pedido em
~2,2 rad/s efetivos. Previsão: `wz_max:=0.5` tem de derrubar a amplitude do yaw
abaixo de 30°. Se não derrubar, parar de girar knob e instrumentar a geometria
do seguidor (o ângulo que ele pede contra o desvio lateral, ponto a ponto).

🔧 **Dívida nova**: `corrida_nav.py` não encerra ao entrar no raio de chegada —
gastou 51 s de robô parado em corrida de 8 s, e isso derruba a fração de
`raw_v` do critério para 77,6% quando medida na fase certa dá 92–94%.

## 🎉 2026-08-12 (11ª leva) — O ROBÔ VAI RETO COM O NAV2, e o ganho era o dono do S

`a_dec` do `heading_controller` de **0,3 → 0,1 rad/s²**. Mesma pilha, mesmo
alvo, `bt_navigator` planejando e replanejando 8 vezes. Reação do dono:
*"RETO RETO RETO, LINDO LINDO, PERFEITO"*.

```
                       referência   yaw     |y| máx   chegada
com a peça, a_dec 0,3     43,8°    62,8°    0,168 m   0,054 m
a_dec 0,3, ff de ontem    30,6°    32,9°    0,106 m   0,087 m
olhar 0,60 (piorou)       38,1°    42,6°    0,179 m   0,134 m
a_dec 0,1                 14,7°    10,0°    0,067 m   0,037 m
```

**Previsão: yaw abaixo de 30°. Entregou 10,0°** — e a melhor chegada do dia.

🔵 **O achado que explica o resto: a REFERÊNCIA também caiu (30,6° → 14,7°).**
Baixar o ganho não fez só o robô obedecer melhor; fez a ORDEM ficar mansa. É a
prova do ciclo fechado que a 10ª leva tinha deduzido no papel:

```
desvio lateral -> rumo_para(robô, ponto a 0,30 m) pede ângulo grande
              -> lei responde com wz alto (a placa entrega ainda mais)
              -> passa da linha -> desvio lateral do outro lado
```

O seguidor **aponta para o ponto** (`rumo_para`, sem termo de erro lateral),
então quem controla a amplitude da ordem é o quanto o robô sai da linha — e
quem faz ele sair da linha era o próprio ganho. **Quebrar o ciclo no ganho
resolve as duas pontas.** Por isso mexer no `lookahead` não resolvia: ele muda
o braço da alavanca, e o ciclo se reajusta em torno do novo braço (medido:
`atan(0,10/0,30) = 18°` e `atan(0,18/0,60) = 17°`).

⚠️ **Isto é a terceira vez que o mesmo remédio funciona neste projeto**: 06-08
baixou `kp`/`ki` 4,1× e matou o S das retas; 023 tirou o pivô do caminho porque
a placa não entrega módulo; agora `a_dec` 3×. **Contra 0,94 s de tempo morto, a
resposta tem sido sempre baixar ganho, e nunca melhorar o modelo.** Vale para o
artigo.

⚠️ **n=1**, e a régua honesta continua sendo faixa contra faixa. O que sustenta
a conclusão aqui é o TAMANHO do efeito (3,3× no yaw, com a referência caindo
junto) e o fato de a previsão ter sido escrita antes.

⏳ **O que falta antes de chamar de resolvido**: repetir 2 ou 3 vezes para ter
faixa; e ver como ele se comporta perto de parede (passo 7), que é o teste que
o dono quer de verdade. O `a_dec: 0.1` fica no `movimentacao.yaml`, com o
racional escrito no próprio arquivo.

## 🧹 2026-08-12 (12ª leva) — A faixa confirma o ganho, e o fantasma do costmap é o DONO

Repetição do `a_dec: 0.1` para ter faixa, e o susto que virou prova.

```
a_dec 0,3 controle              ref  30,6°   yaw  32,9°   |y| 0,106 m
a_dec 0,1  corrida a            ref  14,7°   yaw  10,0°   |y| 0,067 m
a_dec 0,1  corrida b            ref 154,0°   yaw 147,3°   |y| 0,640 m  🔴
a_dec 0,1  corrida c (limpo)    ref  22,4°   yaw   6,5°   |y| 0,119 m
```

🟢 **A faixa fecha**: 6,5° e 10,0° contra 32,9° do controle. 3–5×, com a
previsão escrita antes. Deixa de ser n=1.

🔴 **A corrida `b` saiu virando 48° para a ESQUERDA logo no início**, com o alvo
a 2,04 m em linha reta à frente. O dono viu e perguntou por que o robô "se
perdeu". Ele não se perdeu — **obedeceu a um plano torto**, e a causa foi
provada sem mover o robô, pedindo o mesmo plano antes e depois de limpar:

```
mesmo ponto, mesmo alvo
ANTES de limpar    2,27 m de caminho para 2,00 m de reta    1,13x
DEPOIS de limpar   2,00 / 2,00                              1,00x
```

Não houve engasgo de pose (nenhum salto acima de 0,15 s no CSV): não era o LIO.

➡️ **E o fantasma é o PRÓPRIO DONO.** Hipótese dele, e ela explica tudo: o
Mid-360 enxerga 360°, então **enquanto ele pega o robô na mão para devolver ao
ponto de partida, o corpo dele é marcado** — e no costmap global a marcação é
**permanente** (decisão 015: sem janela rolante, sem raytrace, com `map→odom`
fixa). Ele se afasta e senta; a silhueta fica. O plano da corrida seguinte
desvia de uma pessoa que não está mais lá, à esquerda do ponto de partida —
exatamente para onde a `b` foi. Casa também com o `plano VAZIO` para 4 m.

✅ **REGRA NOVA DE PROTOCOLO, e ela entra no roteiro**: **limpar o costmap
global depois de recolocar o robô e antes de cada corrida.**

```bash
ros2 service call /global_costmap/clear_entirely_global_costmap \
    nav2_msgs/srv/ClearEntireCostmap
```

⚠️ **Isto é remendo de bancada, não conserto.** Enquanto a marcação global for
permanente, qualquer pessoa que passe perto do robô vira obstáculo eterno — e
em operação de verdade ninguém vai limpar costmap na mão. O conserto de
engenharia é a marcação global ganhar esquecimento (janela rolante ou raytrace
de limpeza), e isso é decisão própria, não knob de sessão.

🔧 **Erro meu de condução, registrado porque a regra existe para isto**: emendei
a corrida `b` e ia emendar a `c` sem pedir posição e sem esperar o "pode",
apoiado num "pode" dado para UMA corrida. O dono cortou. Uma corrida por vez, e
o "pode" é por corrida — ainda mais aqui, onde entre uma e outra ele PRECISA
entrar no campo de visão do sensor para recolocar o robô.

## 2026-08-13 — O MAPA DO PRÓPRIO ROBÔ, E A INFLAÇÃO ERA A CULPADA (robô)

Sessão no robô real, no andar 3 do estágio, na sala de sempre. Objetivo do
roteiro: passo 6 (mapa + AMCL). Terminou com o robô andando **reto com mapa**,
que é o que faltava desde 12-08.

### 1. O `/scan` estava morto havia horas, e ninguém sabia

O primeiro achado nem era o assunto da sessão. Com a pilha de pé:

```
20:00:54  base sobe, scan_2d (pointcloud_to_laserscan) começa, /scan vivo
20:05:47  scan_2d MORRE com exit code -9 = SIGKILL
```

Não foi OOM (11 GB livres, zero evento no kernel): foi **SIGKILL na mão**, a
assinatura de um `pkill` de limpeza que levou junto um nó que ninguém queria
matar. É a armadilha do `pkill -f` de novo, com vítima nova — e eu mesmo caí
nela **duas vezes** durante esta sessão, matando a própria sessão ssh porque a
linha do ssh continha o padrão.

Consequência escondida: **as corridas de 12-08 à noite rodaram sem `/scan`**. O
`path_follower` gritou `emperrado, mas SEM medida do vão traseiro` a cada 5 s a
noite inteira. A ré da 025 esteve inerte — não invalida "o robô anda reto", mas
significa que a rede de segurança não existia.

### 2. O mapa do estágio não serve para esta sala, e isso tem número

O passo 6 mandava localizar contra `maps/andar3/scan_andar3_ajustado`. Com o
AMCL de pé e a pose semeada, e depois por **busca exaustiva** da melhor pose
possível na sala inteira:

```
pose semeada         47,2% dos feixes sem parede nenhuma perto
melhor pose possível 41,4% a menos de 0,15 m, erro mediano 0,300 m
esperado (12-08)     100% dentro de 0,15 m
```

Não é pose errada, é **mapa errado**. O `ajustado` é a versão LIMPA de uma
planta do estágio, e a limpeza que dobrou a folga p10 (0,212 → 0,400 m) foi
apagar a mobília. A sala real está cheia de coisa. Palavras do dono quando eu
ainda insistia em achar a pose: *"ela ta cheia de coisa, mas no mapa foi tirado
[...] vamos criar um novo mapa então"*. Ele estava certo e eu estava caçando
pose de um mapa que não existia.

### 3. O robô desenhou o próprio mapa

Decisão **028**: `mapeia.launch.py` sobe `slam_toolbox` em mapping mais a cadeia
de comando do humano (`twist_mux` → `compensador_rumo`), e **não** sobe AMCL,
`map_server`, `tf_map_odom` nem autonomia — os três primeiros brigariam por
`map → odom`, e o último seria robô perseguindo mapa que muda debaixo dele.

⚠️ Achado de ferramenta: **`use_lifecycle_manager: False` NÃO faz o
`slam_toolbox` se auto-ativar no Jazzy.** Ele nasce `unconfigured` e fica lá,
calado, sem erro — o sintoma é `/map` que nunca aparece. Entrou um
`nav2_lifecycle_manager` com lista de um nome.

O dono dirigiu por teleop pela sala e pelo corredor. Mapa salvo em
`maps/sala_andar3/` (197 × 636 células). ⚠️ O `map_saver_cli` estoura o timeout
default de 2 s neste NUC: `-p save_map_timeout:=30.0`.

**A régua do mapa novo, contra o mesmo scan:**

```
                             <0,15 m de parede   erro mediano
mapa do estágio (limpo)           41,4%             0,300 m
mapa desenhado hoje               97,7%             0,050 m
```

### 4. A pose inicial sem tela: busca exaustiva em vez de chute

O NUC não tem tela e o dono lê coordenadas de figura, não de RViz. O que
funcionou foi **busca por força bruta**: transformada de distância do mapa,
varredura de (x, y, yaw) sobre todas as células livres com folga ≥ 0,25 m,
pontuação robusta (fração de feixes a menos de 0,10 m de parede) para o corpo do
dono dentro da sala não estragar a conta. Sai pose com 99% dos feixes dentro de
0,15 m, e vai pro AMCL por `/initialpose`.

⚠️ **A pose envelhece**: uma correção calculada de um scan de minutos antes foi
recusada pelo filtro (o AMCL assentou 0,26 m ao lado). Capturar, buscar e
empurrar **sem intervalo**, com o robô parado, resolveu — 98,9% e depois 99,7%.

### 5. 🎯 A INFLAÇÃO ERA A CULPADA — e a previsão passou

Primeira corrida com mapa, alvo a 2,5 m, `inflation_radius: 0.50` (a de
produção): ele **chegou sem encostar em nada**, mas passeando. O dono viu:
*"ele fica perdidinho até chegar no goal"*. O CSV concordou, e apontou o dedo:

```
                     chegou   referência    yaw     v não-nula   caminho/reta
inflação 0,50        26,1 s      83,8°     103,2°     41,9%        1,45x
inflação 0,20         8,1 s      23,4°      14,0°     87,1%        1,02x
12-08, SEM mapa       9,5 s      14,7°      10,0°       —          1,09x
```

Quem passeava era o **PLANO**, não o robô: a referência de rumo excursionava
83,8° e o yaw obedecia. Mesmo veredito de 12-08, muito pior. A previsão escrita
ANTES da corrida ("a excursão cai para a casa de 20–30°") saiu **23,4°**.

**1,02× é reta.** Com mapa e AMCL, o robô ficou igual à corrida sem mapa que o
dono lembrava, e mais rápido. A `inflation_radius: 0.50` foi escolhida em 05-08
para a porta de 0,90 m da pista SIMULADA; nesta sala, onde 35,4% das células
livres estão a menos de 0,32 m de alguma coisa, ela não recusa plano — ela
**entorta** o plano.

⚠️ O `corrida_nav.py` reportou 1,85× nas duas corridas porque **não encerra na
chegada**: 52 dos 60 s foram robô parado no alvo. Medido até a chegada é 1,02×.
Dívida do instrumento já anotada em 12-08, agora mordendo de novo.

### 6. A ré saiu do nada, e a culpa foi minha

No meio da sessão o robô recuou sozinho. O dono viu e reclamou. O log:

```
EMPERRADO a 1.97 m do objetivo — ré de até 0.30 m (vão medido atrás: 0.98 m)
fim da ré: recuou 0.31 m em 6.2 s
```

**Quem mandou o robô andar fui eu**: o `tools/banco/plano.py` está documentado
como "planeja sem mover o robô", e é verdade na bancada — mas com a pilha
inteira de pé ele publica um plano, e o seguidor obedece **plano**, não
objetivo. A ré só pôde agir porque o `/scan` tinha voltado.

Entrou `re_max_seguidas` como argumento de launch (`0` desliga a ré), porque o
nó lê o parâmetro na subida e não tem callback — `ros2 param set` não chega lá.
É band-aid, e o dono já apontou o conserto certo: *"o ideal era ela não sair e
sim só poder ser ativada quando tiver um destino"*. Amarrar a ré a **objetivo
ativo** mata a causa; fica para a próxima leva.

### O que fica aberto

- a ré amarrada a objetivo ativo (acima), e o `plano.py` que dirige o robô sem
  avisar — os dois são a mesma família: "quem pode mandar o robô andar?";
- o `corrida_nav.py` que não encerra na chegada e polui tortuosidade e `raw_v`;
- a régua de folga: o `maps/andar3/README.md` diz p10 0,400 m e 7,5% de "corpo
  não cabe"; recalculado hoje pela definição que o próprio README descreve, dá
  p10 0,100 m e 37,4%. Um dos dois cálculos está errado — dívida de dev.

### 7. O serviço web entrou no ar, e o RViz saiu de cena

Pedido do dono no meio da sessão, depois de esbarrar pela terceira vez no botão
errado: *"toda hora clico no estimate pose nessa porra, quero logo o meu serviço
web funcionando"*. A `controle_web/` inteira veio do robô 1 no clone e **não
precisou de código novo** — ela já publica em `/web_vel`, que é exatamente o
canal de prioridade 50 que o `twist_mux` deste robô declara.

O que faltava era operacional, e são três coisas que a próxima sessão precisa
saber:

```
pip install --user --break-system-packages flask flask-socketio simple-websocket
ROBOT_MODE=nav2     # default é 'teleop', e em teleop o clique-para-ir nem existe
WEB_TELEOP=on       # sem isso o nó sobe mas não publica: web vira só visor
```

Sobe em `http://<robô>:5000`. Câmera (falta `ffmpeg`) e monitor de tensão
(`wheel_msgs` é a MEGA do robô 1) ficam desligados e não fazem falta.

Veredito do dono: *"o resto ta tudo funcionando, sem precisar mais do rviz"*.

### 8. 🔴 E O SEGUIDOR ESTAVA MORTO — defeito meu, do mesmo dia

Primeiro objetivo pelo web: goal recebido, plano desenhado na tela, **robô
parado**. Sem mensagem culpando ninguém. O log do seguidor:

```
TypeError: unsupported format string passed to NoneType.__format__
  path_follower.py:526, em entra_na_re
process has died [pid 16332, exit code 1]
```

**A causa fui eu.** Para atender *"só não manda ele pra trás"* expus
`re_max_seguidas` como argumento de launch e passei `0`. Com teto zero a guarda
`res_seguidas >= re_max_seguidas` é verdadeira na PRIMEIRA vez, e a mensagem
formata `dist_antes_da_re` — que só existe **depois** de uma ré ter acontecido.
Com a ré desligada, nunca há primeira ré. O nó morre na primeira vez que o robô
emperra.

E o pior: **o knob certo já existia**. `re_habilitada` (default `True`) tem
mensagem própria e reinicia o contador de progresso. Eu não procurei antes de
criar outro. Dois consertos entraram: `re_max_seguidas <= 0` cai no mesmo ramo
do desligamento explícito, e a mensagem não formata `None` nunca mais.

➡️ **A lição, e ela vale para o artigo**: knob novo que exercita caminho de
código nunca exercitado é mudança grande disfarçada de parâmetro. O crash não
estava no meu código — estava esperando desde a 025, num ramo que nenhuma
configuração alcançava.

### 9. 🟢 ELE ATRAVESSOU A PORTA — com mapa, AMCL e o web mandando

Com o seguidor vivo e a inflação em 0,20, o dono mandou o ponto pelo web:

> *"FOI LINDO ELE ATRAVESSOU A PORTA E TUDO"*

É a primeira vez que este robô sai da sala sozinho, contra mapa próprio,
localizado por AMCL, com destino clicado numa tela. E logo depois travou do
outro lado — **porque a ré estava desligada**, exatamente o band-aid que ele
tinha pedido de manhã. Religada (`re_habilitada` default), ficou para o último
teste da sessão.

⚠️ A bateria acabou duas vezes no fim da sessão e o NUC caiu junto. Nada se
perdeu: mapa, decisões e código já estavam no origin.

### O procedimento que subiu tudo, para não redescobrir amanhã

```bash
export ROS_DOMAIN_ID=42        # a pilha de 12-08 estava no domínio 0; combinar
ros2 launch robot_base base.launch.py
ros2 launch robot_motion pilha.launch.py sim:=false \
    mapa:=$PWD/maps/sala_andar3/sala_andar3.yaml localizacao:=amcl \
    pose_x:=<x> pose_y:=<y> pose_yaw:=<yaw> \
    curv_frente:=-0.9145 curv_medido_em:=2026-08-11
cd controle_web && WEB_TELEOP=on ROBOT_MODE=nav2 python3 app.py
```

⚠️ **Nunca `pkill -f`** — matou a sessão ssh duas vezes hoje, e foi o que já
tinha matado o `scan_2d` ontem. Matar por PID, e conferir órfãos.

### 10. A PORTA, TRÊS VEZES — e a terceira ele bateu

O último bloco da sessão foi o dono mandando pontos pelo web, com o robô
atravessando a porta da sala. Três tentativas, e elas contam uma história em
ordem decrescente de qualidade:

```
1ª  atravessou LIMPO, fazendo o que o planejador mandava   "FOI LINDO"
2ª  foi DE CARA na porta, emperrou, a ré rodou 8 s e não saiu do lugar,
    o planner recusou ("start é obstáculo") e ele BATEU
3ª  foi de cara na porta de novo, mas fez uma curva forte para a esquerda
    no fim e passou
```

⚠️ **As duas últimas têm ressalva de bateria, e é do dono**: *"isso
provavelmente é bateria, então não dá para levar essas duas últimas em
consideração total; amanhã vou carregar ele antes"*. A bateria acabou logo
depois e o NUC caiu junto — duas vezes. **Não foi lida em volt nenhuma vez na
sessão**, o que é a mesma falta de 10-08.

O que o log da 2ª tentativa registrou:

```
planner   GridBased failed to plan: "Either of the start or goal pose are an
          obstacle"      -> ele JÁ estava colado na porta ao pedir plano
reflexo   PolygonStop 4x em 9 s
seguidor  emperrado e sem vão para recuar — atrás há 0.00 m
seguidor  EMPERRADO a 7,09 m do objetivo — ré de até 0,30 m (vão atrás: 1,02 m)
seguidor  fim da ré: recuou 0,01 m em 8,0 s        <- 8 s de ré para 1 cm
```

🔴 **ACHADO NOVO: a ré foi acionada e foi INEFICAZ.** Ela mediu 1,02 m livres
atrás, comandou recuo, bateu no teto de 8 s e o robô andou **1 cm**. As duas
hipóteses, e nenhuma está testada: (a) o comando de ré está abaixo da zona
morta da placa — o mesmo `deadband` da decisão 020, que decide o MÓDULO e não
obedece pedido pequeno; (b) o robô estava fisicamente encravado na quina da
porta. ⚠️ Com bateria baixa as duas ficam contaminadas: placa com pouca tensão
é exatamente o que faz comando virar nada. **Repetir com o robô carregado é o
primeiro item de amanhã.**

### 11. 🔴 O CRITÉRIO ENDURECEU: ELE NÃO PODE BATER

Palavras do dono, fechando a sessão: *"o pior foi ele bater, ele não pode bater
de jeito nenhum"*.

Isto **endurece** o critério de 12-08 (o reflexo só deve disparar por surpresa;
o que é parado e está no mapa tem de ser desviado antes). O de 12-08 media
disparo do reflexo; este mede contato. **Colisão reprova a corrida inteira**,
qualquer que seja a explicação — bateria, mapa, sintonia.

E o mecanismo por trás dela já tem nome e é dívida velha: **ele entra torto na
porta**. O dono descreveu exatamente isso, e a evolução dentro da sessão é a
pista boa: *"na primeira tentativa foi perfeitamente, fez o que o planner
mandava, depois começou a errar o caminho do planner"*. É o **erro de trajeto do
seguidor** (dívida nº 1 do ESTADO: p50 0,128 m contra 0,118 m de margem num vão
de 0,90 m) — o plano está certo e quem sai dele é o seguidor.

### O saldo do dia, em uma linha

Saímos de **nada provado do Nav2 com mapa neste robô** para **o robô
atravessando uma porta sozinho**, com mapa que ele mesmo desenhou, localizado
por AMCL, com destino clicado numa página web — e voltando quase por ela. O que
falta é ele não bater.

### Amanhã, na ordem

1. **Carregar a bateria ANTES**, e ler a tensão no início e no fim (dívida de
   10-08 que voltou hoje);
2. repetir a porta com o robô cheio: a 1ª tentativa de hoje diz que ele
   consegue; as duas seguintes podem ter sido tensão;
3. se a ré de 8 s para 1 cm se repetir com bateria cheia, é a zona morta da
   placa (020) e não a geometria — e aí a ré precisa de comando acima do piso;
4. amarrar a ré a **objetivo ativo** (pedido do dono), matando a ré-do-nada que
   o `plano.py` provocou;
5. o erro de trajeto do seguidor, que é quem entorta a entrada na porta.

## 🔎 2026-08-14 (3ª leva) — A CAIXA DO REFLEXO É QUE NÃO CABE NA PORTA (só análise)

> Decisão **041**. Nenhuma corrida nova: as mesmas 10 do A/B da histerese,
> relidas com outra pergunta. **O Gazebo não subiu e o robô não foi ligado.**

O dono cortou o assunto pela raiz: *"o door crossing nunca será implementado
aqui. Pode fazer as medidas, mas quero essa porra seguindo o plan direito, só
arrumar os parâmetros"*. As medidas responderam melhor do que o pedido.

### O seguidor já segue o plano, e a régua tinha um viés meu

`|desvio_lateral|` p50 de **2,5 cm** (era 11 cm em 13-08), e as travadas não se
separam das passagens em nenhum percentil. Não sobrou defeito de seguimento
para arrumar por parâmetro.

⚠️ **E a primeira leitura foi um artefato que quase virou conclusão.** Filtrando
por `v_alvo != 0`, a separação saía **perfeita e invertida** — as travadas
seguiam o plano *melhor*. Motivo: na travada o seguidor continua **pedindo**
velocidade por ~70 s com o reflexo zerando depois dele, e o robô fica parado em
cima do plano, enchendo a amostra de `e_lat ≈ 0`. Filtro de "está andando" tem
de olhar deslocamento **medido**, nunca o pedido. Primo do erro da 023.

### O plano entra mais torto que o robô

No plano da porta o **plano** cruza a 5–13 cm do centro com −18° a 0°; o
**robô** cruza a 1–7 cm com −20° a +5°. Ou seja: colar mais no plano
(`k_lat`) mandaria o robô para o defeito. Dá um segundo motivo, geométrico,
para o `k_lat = 1,0` ter reprovado na 040 — independente da CPU faminta.

### A causa, e a 040 tinha acusado o polígono errado

`/collision_monitor_state`: nas 4 travadas o **`PolygonStop`** segura 61–64 s e
o `PolygonApproach` aparece 0,0–0,1 s. Desenhando caixa e corpo na pose de cada
travada:

```
folga do CORPO até a jamba    +0,049 a +0,069 m   (cabia, e sobrava)
folga da CAIXA na mesma pose  −0,017 a +0,002 m   (vetava)
```

Quatro poses independentes, todas a menos de 2 cm de zero, nenhuma encostando
em nada. O canto é sempre a **quina de trás do lado de dentro da curva**.

🔴 **E a razão é aritmética**: somar 5 cm por FACE empurra a QUINA em 5·√2 =
7,1 cm. A caixa anunciava 5 cm de margem e cobrava 7,1 justo onde o vão de
0,90 m não tem — a 25° o corpo já gasta 17 dos 22,3 cm de orçamento por lado.

**Conserto**: margem medida na quina, 3 cm (traseira 0,2375 · lateral 0,2475).
Frente **inalterada** — varrida de 0,35 a 0,2165, ela não move a folga 1 mm, e
o pedido do dono depois da batida fica de pé. Invariante nova no
`test_configs_coerentes`, verificada por mutação. 324 verdes.

### O que fica para a próxima

Rodar o protocolo de 5 corridas com o dono na tela. Linha de base com a máquina
limpa: **3/5**. Previsão escrita antes: as travadas somem; o que sobrar de
falha tem outra causa. E o robô **continua entrando torto** — isso não conserta
a geometria de entrada, só para de proibir uma passagem que cabe.

## 🟢 2026-08-14 (4ª leva) — O SEGUIDOR NUNCA VIU O PLANO SUAVIZADO

> Decisão **042**. Dados em `docs/dados/2026-08-14-porta-042/`. Nada foi ao robô.

O dono cortou duas coisas: *"o door crossing nunca será implementado aqui"* e,
depois de eu achar que a ré era o separador, *"não precisamos mudar a ré e sim
fazer ele sequer precisar dela pra passar"*.

### Três hipóteses minhas, três mortes por medida

A **caixa do reflexo** (041) foi encolhida e rodada: 3/5, igual à base — nas
travadas novas ela tinha +0,009 e +0,020 m de folga e travou assim mesmo. A
**mira esticada** foi reconstruída offline com os parâmetros de produção: 42%
do tempo esticada nos dois lados, e o portão do vão frontal dispara sim. A
**inflação** foi reproduzida offline (inflação do Nav2 + custo do Theta\*): de
`0,90·3,0` até `1,50·0,7` o caminho não se move um centímetro — quem prende o
caminho embaixo é a zona proibida, não o gradiente. Essa última morreu **sem
gastar corrida**, que é o jeito certo de matar hipótese.

### E o defeito era de fiação

```
/plan            raio mínimo exigido  0,215 a 0,275 m   a máquina fecha 0,37
/plan_smoothed                        0,402 a 0,477 m
```

5 corridas em 5. A decisão 026 escreveu uma árvore de comportamento inteira só
para suavizar, com a justificativa exata — *"o plano do Theta\* ia cru para o
seguidor"* — e o `path_follower` assinava `/plan`. **Desde a 026 o suavizador
trabalha e o resultado ia para o lixo.** Quem dirige este robô não é o
`FollowPath` do Nav2; a árvore consertou o caminho de quem não dirige.

### O resultado

```
             passou   folga na garganta   corridas com ré
antes (041)    3/5      0,037 a 0,063          3 de 5
agora (042)    4/5      0,109 a 0,158          0 de 5
```

**Zero ré.** Em três das cinco o reflexo não agiu nenhuma vez — em 20 corridas
de porta, inédito.

⚠️ **Acertei o número e errei o mecanismo.** A previsão dizia "ele chega mais
reto"; não chega — o yaw na garganta continua +27° a +39°. O ganho é de
POSIÇÃO: com curva que a máquina fecha, ele deixa de ser jogado contra a
ombreira.

### O que eu erraria de novo se ninguém anotasse

**Filtro de "está andando" tem de olhar deslocamento MEDIDO, nunca o pedido.**
Filtrando por `v_alvo != 0`, as travadas apareciam seguindo o plano MELHOR que
as passagens, com separação perfeita e invertida — porque numa travada o
seguidor segue pedindo velocidade por ~70 s com o reflexo zerando depois dele e
o robô parado em cima do plano. Aconteceu **duas vezes no mesmo dia**, com dois
indicadores diferentes. É primo do erro da 023.

**E medir a geometria antes de teorizar sobre ela.** Passei metade do dia
chamando aquilo de "porta". Não é: é um bloco que sobe pelo meio de um corredor
de 1,30 m, e o centro do vão está 22,5 cm acima do centro do corredor por onde
ele vem. Metade das minhas hipóteses supunha parede dos dois lados.

## 🔴 2026-08-14 (NO ROBÔ, 2ª leva) — ELE ATRAVESSOU A PORTA, E DEPOIS SAMBOU

> Primeira vez que os consertos de 039–042 dirigem o robô real. Deploy por
> `git bundle`. CSV em `~/logs_robo2/seguidor_2026-08-14_171807.csv`.

### 🟢 A IDA FUNCIONOU, E É O 042 NO CHÃO REAL

Palavras do dono: *"ele passou a porta na ida perfeitamente"* e, na corrida
seguinte, *"ele passou e chegou"*. O plano suavizado (042) é a primeira coisa
deste dia que se sustenta fora do simulador.

⚠️ E só rodou porque o frame foi destravado na hora: o seguidor pedia
`map→camera_init` e `camera_init` é uma **raiz solta** — o FAST-LIO chama a
origem dele de `camera_init` e o resto da pilha chama de `odom`. Medido: o
offset do sensor é **0,420 m em Z apenas**, zero em X e Y, e a pose crua do LIO
bate com `map→base_link` em 1 mm. São o mesmo lugar com dois nomes. Resolvido em
tempo de execução com um `static_transform_publisher` de identidade
`odom→camera_init`. **Isso ainda não está no repo.**

### 🔴 A VOLTA — ele girou dentro da porta e bateu

```
 t=86,7   x 4,834  y 1,487   entrando centrado
 t=87,6   x 4,604  y 1,620   erro de rumo +53°
 t=88,4   x 4,433  y 1,762   erro +88°   <- cruzou o limiar de pivô (80°)
 t=90,9   x 4,491  y 1,877   giro +115°/s
```

A jamba de cima está em y=1,931. Com o corpo em 1,877 e meia-largura 0,2275, ele
estava **17 cm dentro da parede, girando**. Antes disso derivou **39 cm para
cima** (y 1,49 → 1,88) com o erro subindo 25° → 53° → 72° → 88°. O pivô foi o
sintoma; a deriva foi a causa.

🔴 **E o reflexo VIU e não adiantou.** O dono pediu *"o pivô TAMBÉM DEVE TER O
COLLISION MONITOR"* — ele já tem, e disparou 4 vezes em 8 s. O problema é outro:

```
t=88,7 a 89,6   pedido wz=+1,00   entregue +0,00   vetou
t=89,9          pedido wz=+1,00   entregue +1,00   soltou
t=90,5          pedido wz=−1,00   entregue −1,00   soltou
t=90,8 a 91,1   pedido wz=−1,00   entregue +0,00   vetou
```

O reflexo **pisca**, e cada janela solta é um pulso de giro máximo. Pior:

```
t=90,2   pedido wz=−1,00   entregue wz=+1,00
```

Pedido para um lado, saída para o outro — a retenção de 0,52 s da placa (020).
**Zerar o comando não para o giro.** O reflexo não tem como impedir uma rotação
nesta máquina.

### 🔴 O SAMBA DEPOIS DA PORTA — 20 inversões em 61 s

Pedido do dono, textual: *"deu uns 20 pivos depois da porta, isso não deve mais
acontecer, o pivo dele ta forte demais, ele gira com um simples toque, não
precisa sentar o dedo, ai o freio tentava parar ele e ele ia pro outro lado ai
ele devolvia pro outro e ficou lá sambando"*.

```
20 inversões de sentido em 61 s (19,6/min), TODAS depois da porta (x>5,0)
t=444,9 a 456,4   x preso em 5,30, dist parada em ~4,2 m  -> 11 s no lugar
rumo oscilando +42° <-> +125°
giro alternando  −101 +40 +103 −33 −102 +41 +104 −6 −94 −54 +85 …
v_alvo = +0,500 o tempo TODO
```

🔴 **Não é o estado de pivô.** `v_alvo` nunca caiu a zero: ele pedia para ANDAR
e girava no lugar. E o pico de ±100°/s ≈ 1,75 rad/s é o **módulo único da placa**
(2,204 rad/s, decisão 023): ela não entrega giro parcial, qualquer `wz` vira
módulo cheio para um lado ou para o outro. É a observação do dono, medida.

➡️ **E é por isso que o freio de giro (037) PIORA aqui.** Contra-torque contra
uma placa que só sabe módulo cheio não freia — **inverte**, e vira o próximo
pulso do samba. O freio foi projetado e medido em bancada com o robô livre; em
malha fechada de rumo ele fecha um relé.

⚠️ Isto reforça a hipótese que o ESTADO já lista como a mais importante em
aberto: **relé com tempo morto**. Não é sintonia do seguidor; é a planta.

## 🎮 2026-08-18 — O ROBÔ GANHA UM CONTROLE, E O PERIGO ERA COPIAR CERTO DEMAIS

> Dev, robô desligado. Decisão **043**. Pedido do dono: adaptar o robô 2 ao
> controle Xbox *"assim como foi feito recentemente para o robô 1"*.

### O ponto de partida: o robô 2 não tinha joystick nenhum

O `joy_node` existia no repo, dentro de `robot_nav/launch/robot.launch.py` —
herança morta do clone. O `bin/sobe-robo` nunca chamou aquilo, e o mux da pilha
viva não tinha faixa de joystick. Os dois canais humanos deste robô eram um
terminal SSH e um navegador: **nenhum dos dois operável ao lado da máquina**.

O robô 1 tinha resolvido isso em `ecd6e70`, com a receita de pareamento medida
numa Pi. A tentação óbvia era `cherry-pick`. Ela estava errada.

### As três coisas que a cópia teria quebrado

```
1. publish_stamped_twist   robô 1: false   |   robô 2 PRECISA de true
2. scale_angular           robô 1: 6.0     |   knob anti-skid, PROIBIDO herdar
3. entorno do pareamento   robô 1: Pi/robo/mDNS  |  aqui NUC/bara/IP que muda
```

A **1** é a perigosa, e é a que dá o nome do dia. Ela não dá sintoma:

```
o joy_node sobe                      ✅
o /joy publica                       ✅
o /joy_vel aparece em topic list     ✅
o DDS recusa por type hash           ❌  <- só isto acontece
o robô ignora o controle             ❌  sem UMA linha de erro
```

Toda a cadeia do robô 2 fala `TwistStamped`; a do robô 1 falava `Twist` cru. É
a mesma família de defeito da 040 (frame validado num simulador onde ele por
acaso batia) e do de 29-07 (bitola divergente em quatro arquivos): **a peça
está certa em si e errada em relação à vizinha**. Um `cherry-pick` bem-sucedido
teria produzido exatamente isso, e a descoberta seria numa sessão no robô.

➡️ Virou teste, e o teste foi conferido **quebrando o arquivo de propósito**:
8 mutações, 8 pegadas — `stamped: false`, `scale_angular: 6.0`, dead-man igual
ao turbo, homem-morto desligado, `autorepeat` que não sustenta o timeout do
mux, `sticky_buttons` ligado, nome do nó divergente da chave do YAML, e
joystick abaixo do teclado.

### Duas armadilhas que só apareceram escrevendo a launch

**`autorepeat_rate`.** O `joy_node` só publica quando algo MUDA. Analógico
segurado parado num ângulo = nenhuma mensagem nova = o `timeout: 0.5` do mux
expira = **o mux devolve o robô para a autonomia com o operador ainda segurando
o LB**. O robô sairia da mão de quem está com ele na mão.

**`vivos()` do `sobe-robo`.** O `joy_node` e o `teleop_node` rodam de
`/opt/ros`, fora do padrão `Controle_robo_livox/install` que o `--mata` usa.
Sobreviveriam ao `--mata` e a subida seguinte teria dois `joy_node` brigando
pelo mesmo `/dev/input/jsN` — o "órfão vivo" que o script foi escrito para
evitar, entrando pela porta que eu abri.

### O que o operador vai sentir, e não é defeito do config

Girar **parado** neste robô não é proporcional: módulo único de 2,204 rad/s,
saída cheia segura por 0,52 s, varrendo 93–101° (decisão 023). É a observação
do dono em 14-08 — *"o pivô dele tá forte demais, ele gira com um simples
toque"* — só que agora com um analógico na mão dele.

Baixar `scale_angular` **não resolve** (a placa ignora o teto) e piora o giro
em movimento, que funciona. Escrito no cabeçalho do YAML para não custar uma
sessão a ninguém.

### Uma decisão do dono, tomada com as opções na mesa

*"se eu estiver mandando ele ir reto eu quero o filtro de ir reto sim"* — e ele
já vinha: o `compensador_rumo` fica depois do mux e atende qualquer comandante,
então o feedforward que cancela o arco de 1,22 m pega o joystick de graça.

O que **não** vem é a malha PI (`segura_rumo: False` na pilha), desligada por
um motivo que é só da autonomia — a disputa com o `heading_controller`. Como é
parâmetro do nó e não da fonte, ligá-la para o joystick ligaria para a pilha
inteira. **Escolha do dono: fica como está**, e mede-se o desvio no campo antes
de escrever código. Registrado na 043 §5 para ninguém reabrir sem número.

### Achado de brinde

`scripts/setup_headless.sh` fazia `source` de `scripts/_bluez_fixes.sh`, que
**não existia neste repo** — veio no clone sem o arquivo junto. Com `set -e` no
topo, o setup headless morria ali. Estava quebrado desde sempre e ninguém
tinha rodado; o port do Bluetooth conserta de lado.

### Estado ao fim do dia

```
build                       limpo
suíte                       340 testes, todos verdes
teste novo                  11 casos, 8 mutações conferidas
verificado no robô          NADA — o robô esteve desligado o dia todo
```

O protocolo de campo está na 043 §7, e o passo 2 dele não é opcional:
**reconferir LB=6 e RB=7 com o `js_mapping.py` antes de qualquer corrida**. Os
números vieram medidos do robô 1, não deste controle.

## 🐍 2026-08-18 (NO ROBÔ) — O ANDAR INTEIRO MAPEADO, E O S TEM UM GATILHO NOVO: O PLANO SERPENTEIA

> Tarde no robô, com o dono dirigindo. Saiu: o modo `slam` do `sobe-robo`, o
> mapa `andar3todo`, e — o que mais vale — **a observação do dono a olho nu que
> mudou onde eu estava procurando o S**.

### O que entrou funcionando

```
bash bin/sobe-robo slam                mapeia (slam_toolbox), 5 passos
bash bin/sobe-robo --salva-mapa <nome> grava em maps/<nome>/<nome>
bash bin/sobe-robo mapa=<nome>         navega em outro mapa
maps/andar3todo/                       143 m2 mapeados, 2,7x o sala_andar3
```

Dois defeitos apareceram e foram consertados no caminho, os dois da mesma
família (processo de `/opt/ros` fora do padrão do `vivos()`): o `slam_toolbox`
sobrevivia ao `--mata`, e órfão dele é pior que o do `joy_node` porque ele
continua dono de `map->odom` — a subida seguinte com AMCL teria dois donos da
mesma TF. E o `--salva-mapa` terminava mandando "troque a linha MAPA= no topo
deste script", o dono leu como argumento (naturalmente), digitou
`sobe-robo MAPA=andar3todo` e o script recusou. Recusar a forma que o próprio
script sugeriu é armadilha nossa: agora `mapa=<nome>` existe, e a conferência
acontece ANTES do `mata()`, para um erro de digitação não custar a pilha.

### ⚪ O mapa novo localiza bem, e isso eu tinha marcado como dúvida

Eu commitei o `andar3todo` avisando que ele estava "guardado, não validado". A
primeira corrida nele responde:

```
salto de pose maximo    4,0 cm na corrida inteira (499 s)
saltos > 5 cm           1 amostra em 4946
```

O AMCL não pula. **O mapa serve** — e o balanço que apareceu na corrida não é
localização, o que era a minha suspeita principal ao commitá-lo.

### 🔴 O ACHADO DO DIA, E ELE É DO DONO

Enquanto eu media atuador, o dono olhou o robô e disse:

> *"dessa vez eu vi com meus olhos, o plan ficava mudando um pouco, não tava
> reto, aí o robô tentava ir pro lado e se perdia e começava o S"*

Fui medir as duas metades da frase, e a segunda é a que pega.

**O plano MUDA pouco entre replanejamentos** — a direção que o seguidor miraria
1 m à frente varia p50 0,4°, p90 2,4°, e só 1% das vezes passa de 10°. Não é
churn de replanejamento.

**Mas o plano NÃO É RETO** — e aqui o dono corrigiu a MINHA descrição, que
estava frouxa. Eu tinha escrito "serpenteia", que sugere onda suave. Ele:

> *"ele não fica uma linha, ele fica uma linha quebrada em várias partes, aí
> essas partes que tinham diferenças, pequenas, mas isso ferrava o robô"*

Retas emendadas em ângulo, não ondulação. É outra medida, e é a certa.
Quebrando o plano em trechos retos (tolerância 2°) no corredor:

```
/plan            26 pedacos onde UMA reta bastaria
                 pedaco de 0,32 m (p50)  ·  1,05 m (p90)
                 EMENDA  p50 11,3°   p90 25,6°   p99 45,0°   max 49,8°
                 84% das emendas passam de 5°  ·  60% passam de 10°

/plan_smoothed   56 pedacos (reamostra mais fino)
                 pedaco de 0,15 m (p50)
                 EMENDA  p50  2,6°   p90  3,9°   p99 18,4°   max 45,0°
                 5% passam de 5°  ·  3% passam de 10°
```

➡️ **Onze graus a cada 32 cm de caminho, no plano cru.** A 0,5 m/s isso é um
degrau de rumo a cada 0,64 s — da ordem do tempo morto de 0,94 s da malha. A
referência muda mais rápido do que a máquina consegue responder a ela.

O suavizador ATACA as emendas e ganha muito (11,3° → 2,6° na mediana), mas não
entrega uma reta: sobram 3% de emendas acima de 10° e uma de 45°. E o meandro
de escala grande atravessa inteiro — a medida do resíduo contra a reta:

```
                   ondulacao MAXIMA por plano
/plan              p50 28,9 cm   p90 37,8 cm   max 57,1 cm
/plan_smoothed     p50 29,2 cm   p90 37,4 cm   max 56,6 cm
```

**O suavizador não conserta o meandro.** Ele conserta as EMENDAS, que é outra
coisa. Meandro de 30 cm ao longo de metros não é quina — é a forma da rota, e
suavizar não muda forma de rota.

➡️ **O robô tem 0,32 m de raio. O plano manda ele tecer quase a própria largura
descendo um corredor reto.** E com a mira a 1 m, esse meandro vira ordem de
rumo:

```
29 cm  ->  16,2°        38 cm  ->  20,8°        57 cm  ->  29,7°
```

Dezesseis graus de ordem de rumo, na mediana, num corredor reto onde a ordem
certa é zero.

### 🔴 E AS CURVAS SÃO FORTES DEMAIS — observação do dono, medida

O raio que a máquina fecha é **0,37 m** (medido 29-07), ou seja, curvatura
máxima de 2,70 1/m. O que os planos pedem:

```
/plan            PICO por plano  p50 2,53   p90 3,10   max 4,24 1/m
                 41% dos planos pedem curva que a maquina NAO fecha
                 raio exigido no pico mediano: 0,395 m

/plan_smoothed   PICO por plano  p50 1,72   p90 2,53   max 3,51 1/m
                 8% dos planos ainda nao cabem
                 raio exigido no pico mediano: 0,580 m
```

**Onde isso nasce**: o planejador é `nav2_theta_star_planner::ThetaStarPlanner`
— grade *any-angle*, **sem nenhuma noção de raio mínimo**. Ele não sabe que o
robô existe. É a mesma raiz da reta quebrada: um planejador sem modelo
cinemático produz caminho que ignora a máquina.

**E o suavizador tem a trava certa, com o peso errado.** No `nav2.yaml`:

```
minimum_turning_radius: 0.37     ✅ o raio da maquina, correto
w_curve:                30.0     <- peso de RESPEITAR o raio
w_smooth:           15000.0      <- peso de ficar LISO
```

➡️ **500 para 1.** Quando "liso" e "cabe no robô" discordam, o liso ganha por
500×. Bate com o medido: as emendas somem (o liso ganha) e 8% dos picos seguem
furando o raio. A trava existe e é atropelada.

### A cadeia do S, agora com três elos e não um

```
1. GATILHO      o plano nao e uma reta: e reta quebrada. Emendas de 11,3°
                (p50) a cada 0,32 m no cru; depois do suavizador, meandro
                residual de ±29 cm que vale ~16° de ordem de rumo espuria
2. AMPLIFICADOR a placa so entrega modulo cheio (2,204 rad/s, decisao 023):
                qualquer wz vira giro cheio para um lado
3. REALIMENTA   tempo morto de 0,94 s: medido nesta sessao, o sentido do giro
                so casa com o do comando em 75% das amostras assumindo 0,94 s
                de atraso, contra 47% sem atraso
```

Nenhum dos três é o culpado sozinho, e é por isso que sintonizar ganho nunca
resolveu: **o elo 1 é uma referência errada, e nenhum controlador conserta
referência errada.** Eu estava trabalhando o elo 3 e o dono apontou o elo 1
olhando para o robô.

### ⚠️ O que NÃO está provado

Que o meandro CAUSA o S. Está medido que ele existe, que tem tamanho suficiente
para explicar a ordem espúria, e que o suavizador não o remove. Falta correlacionar
meandro e início do S no tempo, e isso é análise offline — não precisa de robô.

E teve um teste do dono que este log NÃO consegue julgar: ele pôs um peso na
traseira e disse que o robô melhorou depois do meio do corredor. O `y` da
corrida é monótono — ele subiu uma vez, sem voltar — então "onde" e "quando"
são a mesma coluna e não dá para separar *o peso saiu* de *aquele trecho é mais
difícil*. O teste que decidiria é o mesmo trecho duas vezes, com e sem peso.

## 🔬 2026-08-20 (2ª leva, dev) — A BATIDA NÃO FOI POR VELOCIDADE, E O DADO QUE FALTA NUNCA FOI GRAVADO

Sessão sem robô. Peguei o primeiro item do handoff — *"por que ele acelerou a
0,55 m/s acima do `v_max` de 0,50"* — e a primeira coisa que a medida fez foi
**derrubar a pergunta**.

### 🔴 Não houve 0,55 m/s para frente

O `v_alvo` do CSV não pode passar de 0,50 por construção:
`velocidade_de_seguimento()` recebe `v_max` e devolve `min()`. Então os 0,55 só
podiam ser velocidade derivada da pose — e derivada errado. Em `t=854,4` o robô
estava em **RÉ**: `estado=re`, `v_alvo=−0,20`, pose recuando a 0,36 m/s. O
número saiu de tomar módulo na virada ré→frente.

A velocidade real com `v_alvo` cravado em 0,50, na corrida inteira, fora dos
trechos em que o robô foi carregado (n=2247 amostras de pose):

```
p10 0,00    p50 0,26    p90 0,32 m/s
```

➡️ **A máquina nunca entregou o `v_max`.** Ela anda a 0,26 quando pedem 0,50.
A saída "não deixar o robô chegar rápido na porta", que o handoff propunha,
ataca um problema que não existe.

### 🔴 E o segundo alarme falso: a pose não saltou, o robô foi carregado

O handoff registrou saltos de 1,5 m/s como suspeita de LIO. São dois trechos:

```
t= 193,7   15,4 s   (6,51 · 18,33) -> (0,09 · 0,11)   19,3 m
t= 859,4   15,0 s   (6,62 · 17,95) -> (0,04 · 0,06)   19,1 m
```

Quinze segundos, trajetória contínua e coerente, da porta 2 até a origem, a
1,3 m/s — que é passo de gente andando. São as duas vezes em que o dono pegou o
robô e o levou de volta. **Salto de pose é descontínuo; isto é uma viagem.**

### O que a corrida realmente foi: DUAS travessias, NENHUMA passou

```
t=  57-208   y máximo 19,02 em x=6,94     5 rés na porta 2, e volta no colo
t= 762-874   y máximo 18,92 em x=6,99     3 rés na porta 2, e volta no colo
t=2101-2117  não saiu da origem
```

`dist` (ao fim do plano) **nunca desceu de 4,94 m**. O objetivo estava 5 m além
da porta e a porta nunca foi vencida nesta corrida. O dono confirmou por fora o
que o dado sugeria: *"depois de tentar muito passou 1 vez, que foi quando pela
primeira vez chegou no objetivo. Depois nunca mais"* — a passagem única está em
outro CSV, no robô.

E o que ele faz na porta não é chegar rápido demais. É **travar**:

```
travessia 1 na porta (32 s)   v real p50  +0,01 m/s   com v_alvo 0,50
                              |erro rumo| p50 23,6°   max 51,5°
                              |wz| real   p50  2,9 °/s
                              rumo p50 69°  (o corredor é 90°)
travessia 2 na porta (16 s)   v real p50  +0,21 m/s   rumo p50 81°
                              2,3 s PARADO com v_alvo +0,50 e rumo travado
                              em 98,4° — isso é empurrar o batente
```

Dois rumos de chegada bem diferentes (69° e 81°), **mesmo ponto de bloqueio**.

### ⚠️ Minha hipótese, testada e MORTA no mesmo dia

Achei que a mira fosse a culpada: dentro da porta ela trava em 0,37 m, porque o
gate de espaço (`folga_min = 0,60`) encolhe o carrot quando há parede perto —
e com o alvo a 37 cm de um robô de 32 cm de raio, o `rumo_alvo` varia de +62° a
+114° com o alvo praticamente parado. Parecia fechar.

Fui medir a taxa de variação do `rumo_alvo`:

```
corredor livre   p90  38,4 e 40,0 °/s      (a mira estica 20% do tempo)
PORTA 2          p90  40,5 e 37,0 °/s      (a mira NUNCA estica: 0%)
```

➡️ **Igual.** A mira curta não é o diferencial da porta. Hipótese enterrada
antes de virar mudança — que é o único jeito barato de enterrar hipótese.

### 🔴 O limite do dado, que é o achado da sessão

O CSV do seguidor grava o que ele **PEDE**. A cadeia é

```
path_follower ──(rumo_alvo, velocidade_alvo)──▶ heading_controller
   ──/auto_vel_raw──▶ collision_monitor ──/auto_vel──▶ twist_mux
   ──/compensador_rumo/cmd_vel──▶ compensador ──▶ atuador
```

e **nenhum** desses elos estava sendo gravado. Por isso "a lei pede 50° de giro
e o `wz` real é 0,00" não tinha resposta possível: cabem três explicações
incompatíveis (a lei não converteu · o comando ficou sob a zona morta · o
reflexo cortou) e o dado não separa nenhuma.

### O conserto: ligar o que já existia (decisão 044)

`freeze_capture` e `bin/pause_budget.py` já faziam exatamente isso — desde o
robô 1. Chegaram aqui **mudos, e em silêncio**: assinavam `Twist` numa cadeia
`TwistStamped` (casamento não acontece, CSV nasce só com cabeçalho), metade dos
tópicos era do outro robô, o nó não estava na `pilha.launch.py`, e os limiares
do orçamento eram os do skid-steer (`CMD_WZ = 0,50` num robô de `wz_max = 1,0`).

Prova no Gazebo, pilha inteira, bag desligado: os seis elos gravando,
`collision_state` gravando as transições (`APPROACH:PolygonApproach` …
`STOP:PolygonStop`), e o `pause_budget` acertando o diagnóstico da corrida
sozinho — 296,7 s de `movimentacao_muda`, que é o que houve de verdade (o
planner respondeu `no valid path found` ao alvo que pedi).

⚠️ Isto é prova de **fiação**, não da porta. O Gazebo não tem o batente. A
resposta vem da primeira corrida no robô — e agora ela cabe num comando:

```
bin/pause_budget.py ~/logs_robo2/freeze_capture.csv
```

⚠️ Custa alguns kB/s. O bag `--all-topics` custa 560 MB/min e foi ele que
travou o LIO em 20-08. Esta cadeia sobrevive com o bag desligado.

## 📐 2026-08-20 (3ª leva, dev) — A PORTA 2 TEM 70 cm E O ROBÔ 55,5 cm: A CONTA QUE FALTAVA

O dono, cansado: *"ele melhora, vai melhor nas portas, mas o S fica ruim ainda,
aí tenta arrumar o S, ele não passa mais na porta, não sei mais o que fazer"*.

Fui atrás do mecanismo dessa gangorra e achei **outra coisa, maior**.

### 🔴 A medida da porta, direto do mapa

Varrendo o `andar3todoalterado.pgm` na altura em que o robô sempre para:

```
y = 18,0   livre de 5,54 a 9,44   (3,95 m — area aberta)
y = 19,0   livre de 6,64 a 7,29   (0,70 m)   <- A PORTA
y = 19,5   livre de 6,19 a 7,34   (1,20 m)
```

⚠️ **Está nos DOIS mapas** (`andar3todo` e o `alterado`), com a mesma medida —
não é parede que alguém desenhou à mão na edição.

E o footprint do `nav2.yaml` (decisão 032, o contorno real):
**0,555 m de largura × 0,617 m de comprimento**. A largura que o robô ocupa
quando entra torto por θ:

```
projecao = 0,555·cos θ + 0,617·sin θ          vao = 0,700 m

    θ = 0°     0,555 m    folga  +7,2 cm por lado
    θ = 5°     0,607 m           +4,7 cm
    θ = 10°    0,654 m           +2,3 cm
    θ = 12,4°  0,674 m           +1,3 cm   <- LIMITE
    θ = 13,9°  0,687 m           +0,7 cm
    θ = 23,6°  0,755 m           -2,8 cm   NAO CABE
```

> 🔴 **CORREÇÃO (mesma sessão, 3ª leva)**: a conta acima usou o `footprint` do
> `nav2.yaml` (0,555 × 0,6165), que é o **corpo + ~5 cm de margem por lado**.
> O corpo REAL é **0,455 × 0,433** (decisão 032, medido). Refazendo:
>
> ```
>  θ      corpo real   folga/lado      footprint do costmap   folga/lado
>   0°     0,455 m      +12,2 cm        0,555 m                +7,2 cm
>  15°     0,552 m       +7,4 cm        0,696 m                +0,2 cm
>  20°     0,576 m       +6,2 cm        0,732 m                NÃO CABE
>  43,6°   0,628 m       +3,6 cm  <- projecao MAXIMA do corpo
> ```
>
> ➡️ **O CORPO CABE NO VÃO EM QUALQUER ÂNGULO** (máximo 0,628 m contra 0,700).
> O que não cabe acima de ~15° é o footprint do costmap, e a caixa do reflexo é
> maior ainda. **O dono estava certo: é navegação.** A porta é fisicamente
> passável sempre; quem veta é a camada de segurança.
>
> O que NÃO muda: a descentragem medida. Com `x = 7,20` e o vão indo até 7,29,
> a borda direita do **corpo real** fica em 7,43 — **invade 14 cm**. Centrar
> continua sendo o item nº 1.

Agora o erro de rumo MEDIDO nas duas travessias do robô em 20-08:

```
travessia 1   |erro| p50 23,6°   ->  NAO CABIA. Nao passou.
travessia 2   |erro| p50 13,9°   ->  0,7 cm por lado. Quase. Nao passou.
```

➡️ **Ele não passa na porta porque não cabe com o alinhamento que tem.** Não é
o S, não é a lei de rumo mal sintonizada, não é a velocidade. Para passar, o
erro de rumo na soleira tem de ficar abaixo de ~12°, e com margem de verdade
abaixo de 5°. E isso explica o *"passou 1 vez, depois nunca mais"*: com 1 cm de
folga por lado, passar é sorte, não repetibilidade.

### 🔴 E POR QUE O GAZEBO "NÃO ERA EFICAZ"

Porque todas as provas rodavam no `pista_obstaculos`, cujas portas têm
**0,90 m**. O mesmo cálculo:

```
porta de 0,90 m   cabe ate θ ≈ 32°
porta de 0,70 m   cabe ate θ ≈ 12,4°
```

**O simulador vinha testando um problema quase três vezes mais folgado que o
real.** Não é que o Gazebo seja fraco — é que ele estava com a porta errada.

⚠️ Isso recontextualiza o teste de 20-08 que DESLIGOU o gargalo
(`docs/dados/2026-08-20-gargalo-desligado`): ele foi reprovado num cenário em
que o alinhamento não era necessário. O veredito continua válido para aquele
mundo, e não decide nada sobre a porta de 70 cm.

### 🟢 O corredor do andar 3 agora roda no Gazebo

`bin/map2world.py` sobre `andar3todoalterado` → `worlds/andar3todoalterado.sdf`
(1314 caixas). Mapa na convenção do repo em `maps/andar3todoalterado/`. Spawn
no corredor, objetivo do outro lado da porta 2. Primeira corrida
(`docs/dados/2026-08-20-andar3-no-gazebo`):

```
subiu o corredor de y=10,0 ate y=18,79    8,7 m seguindo o plano
NAO passou a porta                        7 rés
|erro de rumo| na aproximacao   p50 14,6°   p90 59,5°   max 83,7°
```

**O defeito do robô apareceu na primeira corrida fora dele.** p50 14,6° contra
13,9° e 23,6° medidos no robô.

### 🔎 E a cadeia de comando (044) já respondeu na estreia

`bin/pause_budget.py` sobre o `freeze_capture.csv` desta corrida, dos 147 s
parados com objetivo vivo:

```
movimentacao_muda[STOP:PolygonStop]   45,6 s   reflexo em STOP e a lei muda
collision                             34,4 s   o reflexo cortou comando vivo
movimentacao_muda[-]                  51,6 s   (antes do 1o estado chegar)
```

➡️ **80 s com o reflexo em STOP na porta.** O handoff de 20-08 registrou o
reflexo como "INOCENTADO por medida", com base em 4 disparos vistos num monitor
ao vivo. Com o registro contínuo, ele é o ator principal da travada — o que era
de esperar quando a caixa tem de caber num vão que o corpo mal atravessa.

### O que isto muda no plano de trabalho

A gangorra "porta × S" tinha uma explicação de segunda ordem (a mira é um knob
só para duas tarefas opostas, e fica curta 87% do tempo). Ela continua de pé,
**mas vem depois**: enquanto a exigência for entrar num vão de 70 cm com menos
de 12° de erro, nenhuma sintonia de seguidor entrega isso de forma repetível.

As saídas, em ordem de custo, ficam para decidir COM o dono:

1. **medir a porta real com trena** — se o vão físico for 0,80-0,90 m, o mapa
   está engordando a parede e o problema muda de lugar (é mapeamento);
2. **alinhar antes de entrar** — é o modo `passagem` que já existe no código,
   com `passagem_alinha_rumo_deg: 10,0` (o número certo, pela conta acima) e
   hoje DESLIGADO (`passagem_estreita_habilitada: False`);
3. **não passar por essa porta** — se houver outra rota, é a mais barata.

---

## 🔌 2026-09-10 (BANCADA, notebook novo) — A MEGA GIROU AS RODAS, E O DEFEITO ERA MEU

**Máquina nova para o robô 3**: Dell Latitude 3490, `ubuntu@10.127.116.150`,
Ubuntu 24.04 + Jazzy. Já tinha o `Controle_robo_web` do robô 1 no `.bashrc` e
a regra udev dele (`/dev/mega` por porta 1-2) — **nenhum dos dois foi tocado**.
Repo em `~/Workspace/Controle_robo_livox`, chegando por `git push` para um bare
no notebook (`~/Workspace/Controle_robo_livox.git`, remoto `notebook`), porque a
chave de GitHub dele é de outra conta e o repo é privado. Faltavam
`ros2-control`, `controller-manager`, `ros2-controllers`, `twist-mux`,
`pointcloud-to-laserscan` e `rosbridge-server` (apt). Build: 8 pacotes.

⚠️ **Bug achado no caminho: `setup_livox.sh` falha em máquina limpa.** Ele
compila `--packages-select livox_ros_driver2 fast_lio robot_base`, e o
`robot_base` depende do `hoverboard_driver`, que numa máquina nova não existe.
Nas máquinas antigas nunca apareceu porque o driver já estava compilado.
Contornado com um build completo. Correção no script: pendente.

### A placa: o que se mediu, na ordem

```
USB-TTL PL2303 direto na placa      beep muda, rodas GIRAM (3 pulsos, 1 desligou a placa)
  volta da placa                     NADA: loopback com jumper RX-TX = 1 de 256 bytes
                                     -> o RX do adaptador está com defeito, não a placa
MEGA, loopback 18<->19 pela ponte    256 de 256 idênticos -> MEGA, UART e ponte bons
MEGA -> placa, pulsos avulsos        nada, nem beep (4 tentativas)
MEGA -> placa, 30 s de zero a 50 Hz
  + dono religa/gira até o beep      GIROU
```

### A causa, que estava escrita desde 01-09

`Controle_robo_web_hover/BANCADA_HOVER_2026-09-01.md` §5: *"Se a placa ficar um
tempo sem receber comando, ela cai em timeout e volta a travar; zeros mandados
depois não recuperam."* Cada teste meu pela MEGA abria a porta (reset de ~2 s
calado), mandava 1 s de zero e o pulso — **sempre numa placa já travada**, porque
entre um teste e outro o dono trocava fio com a placa sem comando. Pelo PL2303
girou porque a placa tinha acabado de ser religada (tinha desligado no tranco).
Nas corridas avulsas o ritmo ainda caía para ~33 frames/s; a que girou manteve 50
cravados. As duas coisas mudaram juntas, então a separação não está medida — mas
a trava é a que o documento de 01-09 já descrevia.

**O custo:** ~uma hora caçando GND, curto, indução e placa muda, com três sketches
de diagnóstico (`hover_sniff`, `hover_escuta`, `hover_ponte`). O dono afirmou
desde o início que Mega, fios e placa tinham funcionado na semana anterior; era
dado, e eu tratei como hipótese. Os sketches ficam — a ponte é o caminho do
driver pela MEGA —, mas o diagnóstico de "GND ruim" e "placa muda" caiu.
> ⚠️ **Retratado em 14-09 (noite): era o GND.** Trocado de lugar e de cabo, a
> placa passou a responder 99,6 quadros/s e o comando ficou constante.

### O que isto vira para o driver

- A ponte (`firmware/hover_ponte`) deixa o `hoverboard_driver` falar com a placa
  pela MEGA trocando só o `device` para `/dev/ttyACM0`.
- **Arme é ritual**: com o comando fluindo sem buraco, religar a placa ou girar
  as rodas até o beep mudar. Qualquer silêncio longo trava de novo.
- A volta da placa segue sem medir: o azul nunca chegou legível (adaptador com
  RX ruim; na MEGA os testes foram com a placa travada). Sem ela o driver roda em
  malha aberta: odometria de roda zerada.
- A geometria do robô 3 (bitola 0,425, raio 0,0835) ainda não está no caminho do
  robô real — o `tracao.launch.py` carrega o `robo2.urdf.xacro`.

### 🔴 Depois: o teclado para demonstração — e o veredito do dono é "um lixo"

O dono quis dirigir no teclado para mostrar aos amigos. `tools/teclado_placa.py`
fala o 0xABCD pela ponte da MEGA, 50 Hz sempre (zero sem tecla), CSV por sessão
em `~/bancada_robo3/` no notebook. Cinco versões na mesma noite:

| commit | como lê a tecla | o que o dono disse |
|---|---|---|
| `637274b` v1 | terminal, segura anda, 0,6 s sem tecla zera | w andou para trás; "não está constante", dá pulsos |
| `147d5a3` v2 | terminal, um toque anda até espaço | "não tá constante"; roda seguia sem tecla |
| `e1a235a`/`d79ee8f` v3 | janela Tk (KeyPress/KeyRelease), a/d pivô | "pior que antes, só aceita às vezes, w e s não fazem nada"; **andou para a frente sozinho** e parou sozinho |
| `ef3e002` v4 | `/dev/input` do kernel (sudo) | "resposta super atrasada" |
| `69e4add` v5 | v4 + compensação de zona morta copiada do `hoverboard_driver` | "um lixo" |
| `5625853` | **volta à v1** (só o sinal da frente em -1) | "também está um lixo"… e depois "foi uma beleza, às vezes ativa o modo flow e aceita tudo na hora" — **sem ninguém mexer em nada** |

**O que os CSVs mostram, em todas as versões:** o notebook mandou a 20,0 ms
(máx 26), sem buraco, e a tecla virou comando no mesmo ciclo. Na v1 o repeat do
terminal funcionou (teclas seguradas viraram trechos contínuos de 1 a 3,8 s) — o
meu diagnóstico de "o terminal não repete" estava errado, porque a v1 só gravava
a tecla quando ela caía no ciclo de envio. O arranque da v1 e da v4 foi idêntico
ciclo a ciclo (15, 30, 45…) e o dono sentiu diferente. No arranque "sozinho" da
v3 o CSV não tem alvo ≠ 0 sem tecla; não dá para dizer se foi a janela perdendo o
"soltou" (w registrado 7,1 s) ou a placa agindo sozinha.

**Conclusão honesta: o que testamos hoje não é confiável.** O mesmo comando,
mandado igual, às vezes vai perfeito, às vezes demora, às vezes não vai — e isso
mudou sem nada mudar do lado do PC nem da fiação. A causa está depois da MEGA e
eu não tenho como vê-la: **nenhum frame de resposta da placa chegou a noite
inteira**, nem com o azul no pino 19. Cada versão nova do teclado foi chute sem
instrumento, e o dono pagou em bateria e paciência.

Hipóteses em aberto, nenhuma medida: (1) a placa alternando entre travada e armada
(a trava de 01-09); (2) bateria das rodas fraca — o primeiro tranco de 300
**desligou a placa**; (3) o azul no 19 trazendo ruído que a ponte repassa e
entope a MEGA, atrasando os comandos (proposta mas **não testada**: o dono não
tirou o fio e mesmo assim oscilou entre bom e ruim, o que enfraquece essa).

### Pendências para a próxima sessão

1. **Fazer a resposta da placa chegar** (bateria, cmd aceito, rpm) — antes de
   qualquer outra mudança; sem ela não há diagnóstico, só palpite.
2. Medir a bateria das rodas sob carga.
3. Ponte que não repassa ruído (só frames 0xABCD válidos) — se (3) se confirmar.
4. Corrigir o `setup_livox.sh` para máquina limpa.
5. Driver ROS pela MEGA (`device:=/dev/ttyACM0`) e geometria do robô 3.

---

## 🎮 2026-09-14 (dev) — O ROBÔ 3 VAI PARA O CONTROLE PELA MEGA

**Pedido do dono:** chegar hoje no laboratório e mover o robô 3 no Xbox, sem
Livox. Só ver se ele responde; movimentação vem depois do lidar.

### O caminho que eu ia propor, e por que caiu

Primeiro li a cadeia do robô 2 (ros2_control + mux + joystick) e achei quatro
jeitos de o robô 3 ficar parado sem erro: controlador recusa comando sem frame
da placa (`open_loop: false` + posição NaN), zona morta (0,30 m/s → ~35
unidades), sentido invertido sem parâmetro no driver, e 10 Hz saindo do PC para
uma placa que trava no silêncio. Propus consertar por config e com um parâmetro
novo em C++.

O dono cortou: **o robô 3 usa MEGA, então a base é a cadeia da MEGA com
protocolo próprio**, e não a do robô 2, que é cheia de compensação. Ele estava
certo, e a leitura do firmware mostrou que era mais do que conveniência: a MEGA
manda a 50 Hz fixos por conta própria e lê a volta da placa. Isso tira da mesa
dois dos quatro defeitos e ainda entrega a pendência nº 1 de 10-09 (bateria e
placa respondendo).

### O que foi feito (decisão 046, plano em `docs/PLANO_CONTROLE_ROBO3.md`)

- `robot_nav/launch/controle_robo3.launch.py`: mega_bridge + cmd_vel_to_wheels
  + joy + teleop + mux. Porta, sinal, bitola e escala como argumento.
- `teleop_xbox_robo3.yaml` (LB/RB, 0,30/0,50 m/s, 1,5/2,3 rad/s) e
  `twist_mux_robo3.yaml` (só o controle; Twist cru dos dois lados).
- `bin/sobe-robo3`: sobe, confere placa/bateria/controle, grava bag em
  `~/bancada_robo3/controle_<data>/`.
- **Não mexi** no firmware nem no `platformio.ini`: a cópia daqui só não tem o
  BNO055, e `--upload-port` substitui a porta fixa. O passo 2 do plano virou nada.

### Prova sem hardware

MEGA fingida em pty (sem `socat` no dev; pty em Python):

| entrada | frame para a MEGA |
|---|---|
| LB + frente | `steer=0 speed=-120` (31 frames) |
| LB + esquerda | `steer=97 speed=0` (39 frames) |
| LB solto | `steer=0 speed=0` |

Conta: 0,30 × 400 × −1 = −120; 1,5 × 0,16125 × 400 = 96,75. ✅

`sobe-robo3` contra MEGA fingida mandando estado: placa 🟢, 36,5 V, bag
gravado, `--mata` limpo.

**Tropeço meu, pego antes de ir:** a primeira versão conferia a placa com
`ros2 topic echo /system/health --once`. O `mega_bridge` só publica o health
quando **muda**, então com tudo certo o `--once` esperaria até o timeout e
diria 🔴. Trocado por `/battery/front` (~5 Hz, `present`).

⚠️ Ao receber SIGINT a launch não derrubou os filhos no teste com pty. O
`--mata` tem `kill -9` de reserva, então não bloqueia o lab. Fica anotado.

### O que ainda não se sabe

- Se o −1 está certo e para que lado é o giro: só com as rodas suspensas.
- Se a placa continua intermitente. Agora o bag mostra.
- Com o `mega_bridge` gravado, o `teclado_placa.py` (que fala com a
  `hover_ponte`) para de funcionar.

### Revisão antes do laboratório — correção do giro

A revisão encontrou um erro operacional no primeiro roteiro: eu tinha escrito
que, com a frente certa e o giro trocado, bastava usar sinais opostos em
`left_wheel_sign` e `right_wheel_sign`. Isso transformaria avanço reto em pivô.

Para hoje, a correção é `bitola:=-0.3225`. Pela cinemática
`v_left = v - wz·bitola/2` e `v_right = v + wz·bitola/2`, a bitola negativa
inverte somente o termo de giro e preserva o termo linear. Frente inteira
trocada continua sendo `sinal:=1.0`. Um parâmetro próprio para o sinal angular
fica para depois do teste, sem aumentar a mudança que vai ao robô hoje.

---

## 🔧 2026-09-14 (BANCADA, rodas suspensas) — O PULL-UP DO PINO 19 ERA O QUE SEPARAVA A PLACA ARMADA DA MORTA

Primeiro teste da decisão 046 no notebook do robô 3. Terminou com a placa
armando pelo `mega_bridge` (decisão 047) e com o defeito de "roda e para" ainda
aberto. Custou a tarde, e boa parte do custo foi meu.

### O que travou antes de chegar à placa

| sintoma na `sobe-robo3` | causa | correção |
|---|---|---|
| `twist_mux` morre ao subir (`symbol lookup error` em `diagnostic_updater::Updater`) | `ros-jazzy-twist-mux` compilado contra `diagnostic-updater` 4.2.7, instalado 4.2.6 | dono rodou `apt install --only-upgrade ros-jazzy-diagnostic-updater ros-jazzy-twist-mux` |
| `/joy` mudo | `device_id` do `joy_node` é índice do SDL, não o N do `jsN`: Xbox era `js1` (`js0` = mouse falso) e SDL 0 | `1e1ffef`: `device_id: 0` |
| placa não responde | ver abaixo | — |

### A sequência

1. **LB + frente, suspenso: nada.** O bag mostrou 419 setpoints diferentes de
   zero (−107) e a placa muda em 844 de 844 leituras.
2. **Religar a placa: nada.** Erro meu: pedi só para religar. A receita de 01-09
   (`BANCADA_HOVER_2026-09-01.md` §5) manda girar as rodas com a mão. Girar
   também não armou.
3. **Teclado pela `hover_ponte`:** gira, mas intermitente. O dono achou o ritual:
   **ligar a placa segurando o `S`** muda o beep e o `W` gira. CSV
   `teclado_20260914_184257`: −250 por 6,5 s a 50 Hz sem buraco e a roda girou
   ~1 s. Minha hipótese "trava quando o comando chega a zero" caiu aqui.
4. **O dado do dono que virou o rumo:** no robô 1, a mesma cadeia com zero a
   50 Hz já muda o beep. Aqui a placa liga morta. "O erro é nosso."
5. **ROS ligando a placa com comando:** LB + frente (−107/−200) e LB + RB + trás
   (+200, 538 setpoints positivos). Morta nos dois. Minha hipótese de sinal caiu.
6. **Instrumento na MEGA** (`384d20b`, `/mega/debug`). Com a placa desligada, a
   MEGA aceitou 20,2 de 20 comandos/s, escreveu `speed=200` a 50,2 Hz, zero
   checksum errado. A primeira medida deu 12,4/s: janela minha mal alinhada.
7. **Teclado `--mega`** (`7c69e35`): mesmo ritual pelo `mega_bridge`. A primeira
   corrida **não valeu**: a MEGA estava com a `hover_ponte` (verify do avrdude
   bateu 2372 bytes), regravada por alguém depois das ~18:58, e o programa deu
   erro na tela ao ligar a placa. O traceback se perdeu → `3d87210` grava o erro
   ao lado do CSV. Regravado e conferido o `mega_bridge`.
8. **`teclado_mega_20260914_191731`:** a MEGA escreveu os mesmos ±250 do teclado
   a 50 Hz por 52 s, todos aceitos, e **a placa não armou**. ROS descartado; a
   diferença estava no firmware da MEGA fora dos bytes.
9. **A diferença:** `pinMode(19, INPUT_PULLUP)` existe na `hover_ponte` desde o
   primeiro commit e não no `mega_bridge`; `Serial1.begin` não liga pull-up.
   `144b739` acrescenta a linha.
10. **`teclado_mega_20260914_192125`:** **armou**, girou com o `W` e parou de
    novo, com a MEGA ainda escrevendo ±250 a 49,7 Hz.

### Meus tropeços (para não repetir)

- Pedi "religar" em vez da receita completa de 01-09, que estava escrita.
- Duas hipóteses testadas no robô sem dado que as sustentasse (zero trava;
  sinal do comando). O dono gastou bateria e paciência nelas.
- `pgrep -f` dentro de `bash -c` casou a própria linha duas vezes: deu "porta
  ocupada" e "teclado ainda rodando" falsos. Conferir porta com `fuser`.
- Um `ros2 bag record` em andamento não abre (mcap sem índice e em buffer);
  matei o gravador para ler e tive de subir outro.
- Uma corrida inteira (`--mega` 190918) sem conferir o firmware da MEGA antes.
  Agora o verify do avrdude vem antes de chamar o dono.

### O que continua aberto

- **Por que** o pull-up do RX da MEGA muda o arme da placa: não medido.
- **Roda ~1 s e para** com comando contínuo no fio, pelos dois firmwares.
- **O retorno da placa nunca chegou**, nem com o pull-up (escuta logo após a
  corrida, placa talvez já desligada). Sem ele, bateria e erro seguem no escuro.

---

## 🔌 2026-09-14 (BANCADA, PC dev, noite) — REFAZER O DIA 1: O AZUL NÃO TRAZ NADA, E A PLACA GIRA SOZINHA

O dono trouxe a MEGA de volta para o PC dev para repetir a bancada de 01-09
(`Controle_robo_web_hover/BANCADA_HOVER_2026-09-01.md`), em que a bateria chegou
pelo azul e as rodas giraram. Mesma MEGA (serial `55632313039351D05132`,
conferido), mesmo PC, fios "iguais ao dia 1" (afirmação do dono), rodas
suspensas. Sessão tensa: o dono cobrou, com razão, que eu tinha refeito o dia 1
ignorando o que a própria tarde tinha provado.

### A sequência

| hora | MEGA | rodas | o que aconteceu |
|---|---|---|---|
| 19:40 | `hover_probe` de 01-09, **sem** pull-up | do robô | 90 s, zero quadros; beep igual depois de girar na mão |
| 19:45 | idem | **do dia 1** | zero quadros; beep igual → rodas descartadas |
| 19:48 | `hover_probe` **+ `pinMode(19, INPUT_PULLUP)`** (`7baa3fb` no `Controle_robo_web_hover`, `.hex` junto) | do dia 1 | **rodas giraram sozinhas**, MEGA mandando só zero, nenhum `g` |
| ~19:55 | idem | do robô | beep mudou; `g` (0,5 s a +300) não mexeu nada; zero quadros |
| 19:59 | `hover_ponte` + teclado | do robô | **anda pelo teclado**, com atraso e inconstante; gira sozinha com o PC em zero |
| 20:05 | idem, teclado lendo a volta (`61d8880`) | do robô | 66 695 bytes no 19 (~225/s parada, ~650/s com comando), **0 quadros 0xABCD válidos**; 3 marcas `m` de giro sozinho, todas com o PC em zero |
| 20:11 | idem, bytes crus em `.rx.bin` (`e3cb011`) | do robô | 64 501 bytes: 4,4 % ASCII; `0xBF` 32 939 e `0xFF` 21 099; `cd ab` acima do fundo |
| 20:15 | `--checksum-errado` | do robô | **rodas imóveis** em 29 s de `s`/`w`/`a`/`d`; mesmo ruído no 19 |

CSVs em `~/bancada_robo3/` do PC dev: `teclado_20260914_195954`, `_200548`,
`_201104` (+ `.rx.bin`), `teclado_chkerrado_20260914_201521` (+ `.rx.bin`).

### O que ficou medido

- **O comando chega e é lido como serial.** Checksum certo: roda obedece;
  checksum invertido: imóvel. Descarta a hipótese que levantei na hora (azul numa
  entrada analógica de acelerador) — ela estava errada.
- **O PC não comanda nada sozinho.** 20 ms cravados (máx 23), e todo comando
  ≠ 0 nasce de tecla. Os giros sozinhos acontecem com o PC mandando zero.
- **A placa não transmite no azul.** O 19 recebe picos curtos (`0xBF`/`0xFF` são
  a linha em alto com um pulso estreito para baixo) e o nosso próprio quadro
  vazando do verde (`cd ab`). Transmissor de verdade não produz isso, e o padrão
  é o mesmo com checksum certo e invertido. Em 01-09 a mesma MEGA recebeu
  `batF = 36,45 V` por esse fio.
- **O pull-up no 19 muda o beep.** Três vezes hoje: sem ele nunca armou, com ele
  armou (19:48 e ~19:55). Mesmo efeito da decisão 047. Mecanismo não medido.

### Meus erros

- **Gravei a sonda do dia 1 sem o pull-up** que a decisão 047 tinha provado
  necessário horas antes. Duas corridas do dono perdidas (19:40 e 19:45).
- **Não avisei que armar podia mover as rodas.** Com o pull-up a placa armou e
  girou sozinha na bancada, sem pedido. "Manda zero" não garante roda parada
  nesta placa; já tinha andado sozinha em 10-09 (teclado v3).
- Tratei a volta da placa como "não chega" por quatro sessões sem nunca olhar os
  bytes crus: o `s.read` do teclado ia para o lixo desde 10-09.
- Levantei a hipótese do acelerador analógico antes de ter o dado que a
  separava; caiu na corrida seguinte.
- Propus uma corrida longa de checksum invertido (3 min parada) para separar o
  giro sozinho; o dono recusou — não mexe roda e não aproxima do objetivo.
  Aberta, não feita.

### O que continua aberto

1. **Por que o azul não traz nada hoje e trouxe em 01-09.** Pedido ao dono: foto
   de em qual cabo da placa o fio está agora e print do vídeo do dia 1.
2. **Giro sozinho** com o PC em zero: da placa, mecanismo desconhecido.
3. **Atraso e inconstância** no comando pelo teclado.
4. Bateria das rodas sob carga: sem multímetro hoje e sem retorno da placa.

### ✅ ~20:25 — ERA O GND

Sem instrumento novo: o dono pediu uma escuta ao vivo do azul
(`tools/escuta_placa.py`, `c7afad5`) para cutucar o cabo, e antes de usá-la
**trocou o fio do GND** — mesmos pontos na MEGA e na placa, só o fio novo;
o antigo estava com defeito (confirmado pelo dono). Na hora: a placa fica sem beep com o
teclado ligado, responde na hora e constante.

`teclado_20260914_202729.csv` (73 s):

| | antes (20:05) | depois do GND |
|---|---|---|
| quadros 0xABCD válidos | 0 | **7 310 (99,6/s), 0 ruins** |
| bytes no 19 | ~225/s, 0xBF/0xFF | 1 793/s |
| bateria das rodas | ? | **40,76–41,00 V** |
| `cmd1,cmd2` da placa | ? | igual ao mandado (`0,250` para 250; `0,-135` na rampa para −150) |
| giro com PC em zero | 3 marcas `m` | **0**: as 108 linhas com roda girando e PC em zero estão todas a ≤ 1,5 s do último comando (desaceleração) |

`spdR`/`spdL` com sinais opostos em linha reta (−122/+120) é o espelhamento das
rodas, não defeito.

**O que isto explica, e o que não mede:** sem referência comum, o 19 lê ruído e o
verde vazando (os `0xBF`/`0xFF` e `cd ab`), e o comando chega corrompido às vezes
— atraso, inconstância e giro sozinho são compatíveis. Que o pull-up do 19
"armasse" a placa (decisão 047) fica como provável caminho de referência pelo
azul; **não medido**, e não testei a placa sem o pull-up com o GND bom.

**Retratação:** em 10-09 escrevi que o diagnóstico de "GND ruim" tinha caído.
Estava errado, e custou 10-09 e a tarde e a noite de 14-09.

---

## 🎮 2026-09-14 (NOTEBOOK, ~20:30–21:00) — O ROBÔ 3 ANDA NO XBOX, E O CONTROLE MANUAL FICA SALVO

Mesma MEGA, com o fio do GND novo, no notebook do robô 3, pelo `mega_bridge`
(decisão 046). Rodas suspensas. Decisão desta sessão: **048**.

### A sequência

| hora | o quê | resultado |
|---|---|---|
| 20:32 | `mega_bridge` gravado (13 152 bytes, pull-up no 19); `sobe-robo3` | controle 🟢; placa 🔴 (desligada) |
| — | dono liga a placa e dirige | **anda pelo Xbox**; giro "lento demais", quase não move, normal e turbo |
| — | conta + `teclado_20260914_202729` | Xbox mandava `steer` 97/148; no teclado, `steer 150` em pivô = ~17 rpm contra ~117 rpm de `speed 250` reto |
| 20:38 | giro 1,5/2,3 → **4,0/7,5** (`b9dcbeb`) e `sinal:=1.0` (o −1 invertia frente **e** giro) | placa 🟢, bateria 40,65 V; dono: **força e direção do giro boas** |
| 20:43 | `/joy` gravado com o direcional (`joy_dpad_204304.csv`) | cima/baixo = eixo 7 (+1 cima); esquerda/direita = eixo 6 (+1 esquerda) |
| — | `dpad_reto` (`c5376e2`): LB + direcional = reta pura, mux 110 | função testada fora do robô, 7 casos |
| 20:48 | `sinal` 1.0 vira padrão (`b4d2c39`); na subida o notebook **tinha suspendido** | caiu da rede, Xbox desconectou |
| 20:50 | subida de novo | não anda: `joy`→`cmd_vel`→`wheel_vel_setpoints` fluindo (até 31 Hz), `/mega/debug` e `/battery/front` **mudos** em 60 s; `dpad_reto` órfão da subida anterior (fora da lista do `--mata`) |
| 20:54 | leitura crua da porta, pilha derrubada | **0 bytes da MEGA em 5 s**, sem "USB disconnect" no kernel |
| 20:55 | dono replugou o USB | 6 117 bytes / 301 quadros em 5 s |
| 20:56 | `sobe-robo3` puro | **anda; direcional reto "não 100%, mas é erro dele"** (dono) |

### Mudanças

- `teleop_xbox_robo3.yaml`: giro 4,0 (normal) / 7,5 (turbo). O "rad/s" não é
  real; calibra com o Livox.
- `controle_robo3.launch.py`: `sinal` padrão **1.0**.
- `dpad_reto` + entrada `direcional` no `twist_mux_robo3.yaml`.
- `sobe-robo3 --mata` inclui `dpad_reto` (`877d632`).
- Notebook: suspensão por inatividade **desligada** (`gsettings`
  `sleep-inactive-{battery,ac}-type nothing`; `sudo` pede senha, a tampa já era
  `ignore`).

### Meus erros

- Pus o `dpad_reto` no launch sem pôr no `--mata`: um órfão sobreviveu.
- Levantei "MEGA reconectou às 20:51" pelo horário do `/dev/ttyACM0`; o kernel
  não tinha queda nenhuma. A leitura crua é que separou.
- O "placa responde 🔴" da subida das 20:48 foi lido como "placa desligada",
  mas a mensagem era `/battery/front mudo` — a MEGA, não a placa.

### O que não foi medido

- **Quanto o direcional desvia da reta.** O bag `controle_20260914_205608`
  ficou sem índice (gravador derrubado); precisa `ros2 bag reindex` antes de
  ler `/hoverboard/wheel_velocities` × `/dpad_vel`.
- Se o pull-up no 19 ainda é necessário com o GND bom.
- Tudo com as rodas no ar: no chão o giro pode pedir mais.

### 21:14 (NO CHÃO) — POR QUE A FRENTE PUXA PARA A DIREITA E A RÉ NÃO

O dono subiu a pilha sozinho e trocou os cabos das rodas na placa (a frente
passou das motrizes para as bobas). Relato dele: **nas duas montagens** a frente
no direcional vai torta para a direita e a ré vai mais reta; o giro continuou
certo depois da troca (bate com a conta: trocar os canais inverte só frente/ré).

**O que o relato já descarta:** "cabos trocados + frente" e "antes + ré" movem o
robô para o mesmo lado físico, cada motor girando para o mesmo lado — e deram
resultados diferentes. Chão, bobas, diâmetro de roda e os motores seriam iguais
nos dois. O que muda é o sinal do comando e qual canal da placa move cada roda.

**Medido** (`reta_chao_211439.csv` no notebook, `/hoverboard/wheel_velocities` e
`/dpad_vel` com carimbo de chegada, LB + direcional, `steer = 0` exato, regime a
partir de 1 s):

| janela | FL (canal L) | FR (canal R) | \|FL\|−\|FR\| |
|---|---|---|---|
| frente 19,6 s | +41,4 | +37,8 | **+8,8 %** |
| ré 28,3 s | −40,7 | −41,1 | −1,1 % |
| frente 35,1 s | +42,4 | +37,7 | **+11,1 %** |
| ré 43,0 s | −39,2 | −40,2 | −2,5 % |
| frente 50,6 s | +43,3 | +39,1 | **+9,6 %** |
| **total frente** (n=857) | +42,3 | +38,1 | **+9,8 %** |
| **total ré** (n=521) | −39,9 | −40,6 | −1,8 % |

**A placa entrega ~10 % mais rpm no canal L que no R com `speed > 0`, no chão,
nas três corridas; na ré, praticamente igual.** Mesmo comando nos dois canais.
Isso também diz que a placa **não está em malha fechada de velocidade** — senão
as rpm se igualariam.

No ar (`teclado_20260914_202729`), `+250` saiu igual nos dois canais (−0,1 %):
**a diferença só aparece com carga.** Sem carga a rotação é a de tensão
aplicada; com carga, o canal que entrega menos torque naquele sentido afunda
mais. Aponta para o caminho de corrente/torque do canal R no sentido positivo
(sensor de corrente, driver, MOSFET, limite por canal) — **não medido**: o
retorno da placa não traz corrente.

Não medido ainda: a antes-da-troca (só relato do dono), e se a diferença cresce
com mais carga (turbo).

---

## 🧩 2026-09-15 (dev, sem robô) — O PUXÃO PODE SER CRÔNICO: O FIRMWARE INVERTE UM MOTOR E NÃO FECHA A VELOCIDADE

O dono lembrou que o **robô 2 tinha o mesmo padrão**: frente puxa para a
direita, ré quase reta. Está medido na decisão 011 (04-08): frente, círculo de
**1,22 m para a direita**; ré, **8,3× menos**. Lá atribuímos a boba + peso, sem
rpm por roda. Duas placas com o mesmo defeito tornam peça ruim menos provável.

**Nosso pacote ROS está fora por construção:** no direcional,
`esquerda = direita = 120` → `mega_bridge.py` manda `steer = round((L−R)/2) = 0`,
o firmware da MEGA repassa sem ajuste, e o protocolo da placa só tem
`steer`/`speed` — com `steer = 0` não há como pedir mais a uma roda. (Não
gravado no fio naquela corrida: `/mega/debug` fora do gravador.)

**O que o firmware EFeru FOC faz por padrão** (fonte em `docs/REFERENCIAS.md`):

| `Inc/config.h` / `Src/main.c` | consequência |
|---|---|
| `CTRL_MOD_REQ VLT_MODE` | tensão, não velocidade: cada roda gira o que a carga deixa |
| `DEFAULT_STEER_COEFFICIENT 8192` (0,5) | o `steer` sai pela metade — explica a decisão 048 |
| `pwmr = -cmdR` (sem `INVERT_R_DIRECTION`) | andando reto, os dois motores giram em **sentidos elétricos opostos** |

### A hipótese (coerente com todos os números, não medida)

Dois efeitos somados, em % de rpm do canal L sobre o R:

- **x** = diferença de canal (a mesma nos dois sentidos);
- **b** = um sentido elétrico rende mais que o outro sob carga, **igual nos dois
  motores** — p.ex. o ângulo fixo hall→comutação do firmware adiantado num
  sentido e atrasado no outro, que nenhum dos dois motores calibra.

Frente: L no sentido elétrico +, R no −  → `x + 2b = +9,8 %`
Ré:     L no −, R no +                   → `x − 2b = −1,8 %`
⇒ **x ≈ +4 %**, **2b ≈ +5,8 %**.

Explica também o ar: sem carga, em `VLT_MODE` a rotação é a da tensão e quase
não depende do ângulo de comutação (+250 no ar: −0,1 %); com carga, o sentido
com ângulo pior dá menos torque e afunda. E explica o crônico: mesmo modelo de
motor + mesmo firmware padrão = mesmo `b` nos dois robôs.

### ⚠️ Correção do que escrevi em 14-09 21:14

"A troca de cabos descarta os motores" estava **largo demais**. Ela descarta
uma **diferença entre os dois motores** (e chão, bobas, peso). **Não descarta um
defeito de sentido igual nos dois motores**, porque depois da troca cada canal
continua usando o mesmo sentido elétrico para "frente".

### O teste que separa x de b (próxima sessão com robô)

**Pivô no chão**, pelo `teclado_placa.py` (sem ROS), `a` e `d`, rpm gravada.
Com o motor direito invertido, no pivô **as duas rodas giram no mesmo sentido
elétrico**: um lado de pivô = ambas em +, o outro = ambas em −.

- rpm do pivô para um lado ≠ para o outro (mesmo `|steer|`) → mede **b**;
- |L| ≠ |R| dentro do mesmo pivô → mede **x**;
- pivôs iguais e L = R → a hipótese cai.

Se `b` se confirmar, as saídas são `SPD_MODE` no firmware (precisa de ST-Link) ou
malha de velocidade por roda no PC com a rpm que a placa já manda.

**Pivô no ar que já existia** (`teclado_20260914_202729`, `steer ±150`, regime
> 1 s): `+150` → média 18,5 rpm, L−R +1,8; `−150` → 19,3 rpm, L−R +1,1. L ganha
nos dois sentidos (compatível com `x > 0`); os dois sentidos diferem ~4 %. **Não
decide**: ~19 rpm é beira de zona morta e sem carga, onde a própria hipótese
espera `b ≈ 0`. O teste vale no chão e com `--giro 400` (~200 por roda depois do
coeficiente 0,5).

**Duas respostas do dono que mudam a leitura:**

- A placa é **igual nos robôs 2 e 3**. Mesmo defeito em dois robôs com a mesma
  placa e o mesmo firmware reforça causa sistemática, não peça ruim.
- ~~Quem gravou o firmware mexeu no `config.h`~~ — **corrigido pelo dono na
  mesma conversa: a mudança foi no ROS do hover, não na placa**, e não chega ao
  robô 3. As placas são do mesmo modelo, unidades diferentes. A configuração
  gravada segue desconhecida; os números medidos são compatíveis com o EFeru
  padrão (a rpm não se iguala; o `steer` sai ~7× mais fraco que o `speed` no ar,
  perto do 0,5 com zona morta), mas `VLT_MODE`, o coeficiente e a inversão do
  motor direito **não estão confirmados**. Regravar as placas com o EFeru foi
  considerado e **descartado pelo dono**.

**Plano B do dono**, se a causa não tiver conserto: inverter frente/ré só na
reta, no código, e o robô passa a andar sempre no sentido elétrico da ré. Com os
cabos já trocados, isso devolve a frente às motrizes. Custos a registrar quando
for decidido: a ré de verdade passa a ser o sentido torto, e a odometria e o
Nav2 precisam enxergar a mesma convenção. Não implementado.

---

## 🔄 2026-09-15 (NOTEBOOK, ~17:00) — O PIVÔ PARCIAL DESMENTE A MINHA HIPÓTESE, E O NOTEBOOK CAI NO CHÃO

Lab. Notebook sincronizado (`fa828f4`), MEGA `55632313039351D05132` em
`/dev/ttyACM0`, nenhuma pilha. Gravei a `hover_ponte` para o pivô pelo teclado;
o dono preferiu o **Xbox** — voltei o `mega_bridge` (13 152 bytes) e montei um
gravador só de leitura com o **`/mega/debug`** (o comando no fio), para filtrar
trechos com o analógico fora do lado. Tropeço meu: gravador primeiro com
`Int16MultiArray`; o tópico é `Int32MultiArray`.

**O notebook caiu do robô** no meio do pivô: `usb 1-1: USB disconnect` às
17:06:30, MEGA voltou como **`/dev/ttyACM1`** às 17:06:38, com a pilha presa no
`ACM0` (sem comando → MEGA zera; robô parado).

**O que foi gravado antes** (`docs/dados/2026-09-15-robo3-pivo-parcial/pivo_chao_170422.csv`):

| pivô | no fio (`/mega/debug`) | FL (canal L) | FR (canal R) | mais rápida |
|---|---|---|---|---|
| esquerda, 5,6 s | steer −484, **speed −17…−21** | −125,9 (trás) | +78,9 (frente) | L, a de trás |
| direita, **1,4 s** | steer +484, speed 0 | +91,0 (frente) | −122,5 (trás) | R, a de trás |

**Leitura, com cuidado:** nos dois pivôs a roda que roda **para trás** gira
mais, e a mais rápida **troca de lado** — não é canal (`x`). No pivô, com a
inversão do motor direito, as duas rodas estão no **mesmo sentido elétrico** e
mesmo assim diferem — não é o `b` da minha hipótese de hoje de manhã. Aponta um
efeito do **sentido físico de cada roda**, comum às duas; a média com sinal é
para trás nos dois (−23,5 e −15,8 rpm): o robô **andaria de ré enquanto gira**.

**Não conclusivo:** o speed −18 do pivô esquerdo sozinho explica ~14 % de
diferença entre as rodas, não 46 %, mas contamina; o direito tem 21 amostras.
E conflita com o relato da troca de cabos (a frente puxando igual nas duas
montagens), que nunca foi medido antes da troca. Repetir limpo antes de mexer em
qualquer explicação. Roteiro de 16-09 no `ESTADO_PROJETO.md`; gravador
versionado em `tools/grava_pivo.py` (com bateria).

---

## 🧱 2026-09-24 (PC de dev, robô DESLIGADO) — A PILHA ESCOLHE O ROBÔ: PASSO 4 DA ETAPA 6

Passo 4 do `PLANO_ETAPA6_ROBO3.md` §7, partindo de `0c27f26` (infraestrutura de
materialização) na `etapa6-pilha-robo3`. Nada de Gazebo, nada de hardware: só a
descrição da launch percorrida num `LaunchContext`.

**O que entrou.** `_robo_do_argv()` lê o `robo:=` do `argv` e devolve **texto**,
nunca `int` — correção do dono sobre o meu desenho: `int('02')` é 2, e "02"
escolheria o perfil do robô 2 antes de ser recusado por não ser o texto "2",
que é escolher robô por conversão. Só `'3'` monta o perfil 3; todo o resto monta
provisoriamente o perfil **seguro** (o 2) e morre na recusa, sem ação nenhuma no
meio. As três bocas da trava: `robo:=` repetido morre na descrição, antes de
existir perfil; contexto ≠ `argv` morre na recusa (e é onde cai o include
programático, porque para ele o `argv` entrega o default "2"); e `robo:=3
sim:=false` morre nomeando as duas coisas que faltam — a fronteira do atuador
real e a localização.

**Uma reordenação, e ela é deliberada.** O `OpaqueFunction(_recusa_robo)` passou
para **depois** do `DeclareLaunchArgument('sim')`, porque a recusa agora lê o
`sim`. Continua antes de qualquer ação operacional, que é o que o contrato pede.

**Onde eu quebrei um guarda e desfiz.** A primeira versão pôs o nome do arquivo
do simulador e os `launch_arguments` em variáveis — e isso tirou a garra do
`test_o_spawn_do_simulador_e_a_pose_do_amcl_sao_O_MESMO_argumento`, que acha o
include por AST pelo nome do arquivo no próprio trecho. Ele ficou vermelho, e
estava **certo**: o jeito de o afrouxar seria mexer no teste. Voltei o nome e os
argumentos para dentro da chamada (o robô escolhido por uma condicional inline),
e agora **uma** chamada serve os dois robôs — o guarda passou a cobrir os dois.

**Mundo, decidido pelo dono:** a pilha mantém `pista_obstaculos.sdf`. Ela também
usa `maps/pista_obstaculos.yaml`, e trocar só o mundo poria o robô numa pista e
o costmap global noutra. O `sim_robo3` sozinho segue nascendo na `pista_livre`;
quando incluído, quem manda é a pilha, e o par mundo/mapa se preserva. A prova
curta vai acontecer num **trecho livre** da pista de obstáculos.

**Dois testes do passo 3 mudaram de motivo, não de rigor.** Eles fixavam o texto
da recusa da etapa 4 ("o perfil entra no passo 4, a pilha na etapa 6") — texto
que deixou de existir quando a pilha aprendeu a subir o robô 3. Um passou a
provar a trava de coerência; o outro usa `robo:="9"` para continuar provando que
o robô fala antes da localização.

**Provas.** Suíte inteira: **1 failed, 1292 passed** — e o único vermelho é
`test_o_mux_do_robo3_tem_as_quatro_faixas`, que é o passo 5 de propósito (o
`twist_mux_pilha_robo3.yaml` não existe ainda). Gate §6(c): parâmetros de cada
nó do robô 2 comparados com os de `1f49981` nas duas bordas, **idênticos byte a
byte** (`sim:=true` 7182 B, `sim:=false` 7133 B), e o robô 2 não criou pasta de
corrida nenhuma. Gate §6(a): o diff não toca `robot_base/`, `robot_nav/` nem os
YAMLs do robô 2.

**O que isto NÃO prova:** nada roda. Percorrer a descrição é aviso cedo — o
grafo vivo, o `use_sim_time`, o `footprint` nos costmaps e o objetivo curto são
os passos 6 e 7, com aviso prévio e "pode".

> 🔧 **Correção, no passo 5 (mesmo dia):** eu fechei esta entrada dizendo que o
> `install/` deste PC tinha a launch antiga e que subir exigiria reconstruir o
> pacote. **Está errado** — o `install/` é `--symlink-install`, e
> `install/.../launch/pilha.launch.py` aponta, via `build/`, para o arquivo do
> fonte. Editar a launch já basta. O que **de fato** precisa de rebuild é
> arquivo **novo**, que não tem symlink ainda — foi o caso do
> `twist_mux_pilha_robo3.yaml` no passo 5.

---

## 🎚️ 2026-09-24 (PC de dev, robô DESLIGADO) — O MUX VIRA CHAVE DO PERFIL: PASSO 5 DA ETAPA 6

Passo 5 do `PLANO_ETAPA6_ROBO3.md` §7, em cima de `7ca5afe`. Sem Gazebo, sem
hardware: só arquivo de configuração e descrição de launch.

**Nasceu `robot_motion/config/twist_mux_pilha_robo3.yaml`**, com as quatro
faixas exatas — `dpad_vel` 110, `joy_vel` 100, `unstuck_vel` 30, `auto_vel` 10 —
e `use_stamped: true`. Sem `key_vel` e sem `web_vel`, e a ausência está escrita
no arquivo como decisão (D4), não como esquecimento: canal humano novo no robô 3
é escopo próprio e não entra por herança do mux do robô 2.

**O mux virou chave do perfil** (`perfil['twist_mux']`), e é arquivo INTEIRO em
vez de reescrita porque o que muda entre os robôs são as próprias faixas —
reescrever folha por folha aqui seria descrever um arquivo dentro de outro. O
perfil 2 devolve exatamente `config/twist_mux.yaml`, o de sempre; o perfil 3
devolve o arquivo novo. A launch parou de escrever o caminho à mão e passou a
consumir só a chave.

**`robot_nav/config/twist_mux_robo3.yaml` não foi tocado** — é o mux do controle
FÍSICO do robô 3, papel diferente, e é por isso que o arquivo novo tem nome
longo: dois arquivos de mesmo nome curto deixariam a próxima pessoa sem saber
qual é o canônico.

**Três testes acompanharam a chave nova.** Os dois que fecham o conjunto de
chaves do perfil (`test_perfil.py`, `test_perfil_robo3.py`) passaram a exigir o
`twist_mux` — o conjunto exato é o contrato, e chave nova tem de passar por lá.
E o `test_a_pilha_monta_pelo_perfil`, que monta um perfil falso, ganhou o mux no
dicionário **e uma asserção nova**: o nó tem de receber o mux do perfil, senão a
launch pode voltar a escrever o caminho à mão sem ninguém notar.

**Tropeço mecânico, e vale registrar porque custa minutos:** o arquivo novo não
aparecia no `share/`, e o teste ficava vermelho por um motivo que não era o
contrato. O `install/` é `--symlink-install` — arquivo **existente** é symlink
para o fonte (editar já basta), mas arquivo **novo** só ganha symlink com
`colcon build --packages-select robot_motion`. Foi isso, não o YAML.

**Provas.** Suíte estática inteira **verde**, e o gate §6(c) refeito agora que o
mux é parâmetro de nó: parâmetros de cada nó do robô 2 **idênticos byte a byte**
aos de `1f49981` nas duas bordas, com o `twist_mux.yaml` aparecendo na
comparação. Gate §6(a): o diff não toca `robot_base/`, `robot_nav/` nem os YAMLs
do robô 2.

**O que isto NÃO prova:** que existe UM mux no grafo com as quatro faixas
**vivas**. Aqui o que se provou é que o arquivo tem as faixas e que o nó recebe o
arquivo. `ros2 param get` no mux de pé é o passo 6.

---

## 🟢 2026-09-24 (PC de dev, GAZEBO headless, robô DESLIGADO) — A PILHA SOBE O ROBÔ 3, E OS TRÊS ACHADOS NÃO ERAM DO ROBÔ 3

Passo 6 da etapa 6: nasceram `bin/valida-etapa6` e `tools/valida_etapa6/`
(`93671b3`), e rodou a **primeira corrida** — `~/etapa6/20260924_104529/`,
**RC 1**. Gazebo headless neste PC; robô e notebook fora, desligados.

**O que a corrida aprovou de primeira** é justamente o que a etapa existe para
provar. O `footprint` vivo nos DOIS costmaps é
`[[0.0825, 0.19], …, [-0.2913, 0.19]]` — o do robô 3 —, e o controle positivo é
gritante: se a reescrita não tivesse pegado, ali estaria o `[[0.35, 0.2775], …]`
do robô 2. Mais: mux com as quatro faixas e `use_stamped` vivos, os dois YAMLs
materializados na pasta da corrida com o bag em `bag/`, `/Odometry` e `/scan`
com publicador **e** mensagem, as duas TFs (`map→base_link`,
`base_link→livox_frame`), publicador único de `map→odom`, nenhum tópico
`WheelSpeeds`, **zero** linha ERROR/FATAL no `launch.log`, e a derrubada sem
órfão com o domínio 47 vazio.

**Os três vermelhos, e a parte que me interessa: nenhum era do robô 3.**

**1. Contei listener errado — erro meu de previsão.** Esperava 4
`transform_listener_impl`, apareceram 3. Copiei o 4 da lista da pilha do robô 2 e
tirei o `/rviz2` da lista de nós **sem descontar o listener que ele carrega
junto**. A conta fecha com dado que já existia: `sim_robo3` sozinho tinha 1 (o do
`scan_2d`, atribuído por execução isolada em 22-09); a pilha do robô 2 COM rviz,
4; a do robô 3 SEM rviz, 3 = 1 + 2 do Nav2. Corrigido para 3 com a aritmética
escrita no arquivo. E ele explicava o segundo motivo do mesmo item: `pronto()`
exige `volateis_invalidos` vazio, então a captura **não tinha como** ficar
pronta — os 180 s do prazo foram gastos por isso.

**2. O bag gravava em relógio de parede.** O `/rosbag2_recorder` apareceu com
`use_sim_time` false: ele é um `ExecuteProcess`, não um `Node`, e nunca recebeu o
parâmetro. Numa corrida em tempo simulado isso põe dois mundos de tempo no mesmo
arquivo de evidência. Eu levei ao dono como possível exceção; a resposta foi
**consertar** — o Jazzy instalado tem `ros2 bag record --use-sim-time`, conferido
no `--help`. Entrou **só no ramo do robô 3**: no robô 2 o comando fica byte a
byte o de `1f49981`, e o mesmo conserto lá muda o carimbo de todo bag de
simulação já gravado no projeto — achado próprio, decisão do dono, fora desta
etapa. ⚠️ Consequência aceita: até a primeira mensagem de `/clock` o gravador não
escreve nada, então o prelúdio da subida sai do bag. Troquei um pedaço do começo,
quando ainda não há simulação, por carimbo coerente no resto.

**3. `/gz_ros_control` também com false — e este não é nosso.** É o nó do plugin
`gz_ros2_control`, que roda DENTRO do processo do Gazebo e é dirigido pelo passo
de atualização do simulador; não há caminho por onde a nossa launch lhe passe
parâmetro. Virou **exceção nominal própria** (`use_sim_time_falso_permitido`),
deliberadamente **separada** dos "parâmetros ilegíveis" — são mecanismos
diferentes, e misturar faria a exceção de um passar pela do outro. Com as travas:
nó exato, motivo, origem da prova, **exceção sem uso reprova**, e qualquer outro
nó com false continua reprovando.

**Método que funcionou, e vale anotar:** o julgamento é **offline**, a partir do
dump da captura. A sessão de Gazebo só observa; quem decide APROVADO/REPROVADO é
código com 45 testes estáticos, cada item com o caso que passa e o que reprova.
Foi isso que permitiu diagnosticar os três achados sem subir Gazebo de novo, e é
o que faz o veredito ser reproduzível da pasta, meses depois.

A pasta `20260924_104529` fica **intacta** — ela é a evidência que referencia
`93671b3`, e por isso o conserto foi commit novo, não amend.

---

## 🔒 2026-09-24 (PC de dev, sem subir nada) — DOIS DEFEITOS DE EVIDÊNCIA, E O SEGUNDO ERA PIOR QUE O PRIMEIRO

A segunda corrida (`20260924_111431`) deu RC 0 em todos os itens funcionais. Fui
conferir a integridade da pasta antes de declarar fechado, e achei dois defeitos
— os dois **meus**, nenhum do robô 3.

**1. O manifesto não fechava contra a própria pasta.** `sha256sum -c SHA256SUMS`
falhava em três arquivos (`console.txt`, `resultado.txt`, `resultado.csv`) nas
DUAS primeiras corridas. Nada estava corrompido: os YAMLs materializados e o bag
batiam byte a byte. O erro era de ordem — eu gerava o manifesto **antes** de
escrever as últimas linhas do resultado. Manifesto que não fecha contra a própria
pasta faz duvidar também do que está certo, e num PIBIT a pasta é a prova.

Conserto: o manifesto é a **última escrita** do validador; `resultado.txt` e
`resultado.csv` são finalizados antes; fora dele ficam só o `console.txt` (log ao
vivo, não pode assinar a si mesmo enquanto é escrito — o conteúdo está
reproduzido no `resultado.txt`, assinado) e o próprio `SHA256SUMS`; o item virou
uma conferência **prévia do escopo** que vai ser assinado; e o validador roda
`sha256sum -c` em si mesmo, com falha forçando RC 1. O `escopo_do_manifesto.txt`
entra no que ele lista: declaração de escopo fora do manifesto é declaração que
se troca depois.

**2. O bag assinado não abria** — e este é o defeito que me incomoda mais, porque
ele tinha cara de estar tudo bem. 229 MB de mcap, e `ros2 bag info` respondendo
*"Could not find metadata in bag directory"*. Evidência que não abre é pior que
evidência que falta: ela parece estar lá.

Causa **medida**, não suposta: no `limpeza.txt` da segunda corrida, os dois
processos que sobreviveram a 20 s de SIGINT do grupo e levaram KILL foram o
`ros2 launch` e o **`ros2 bag record`** (pid 77561, confirmado pelo `argv` na foto
de processos). Morto por KILL, o gravador nunca escreve o `metadata.yaml`.

Levei ao dono com duas saídas — recuperar por `reindex` ou prevenir no
encerramento — e ele escolheu **prevenção localizada no gravador**, sem mexer na
política genérica das etapas 4 e 5. É a escolha certa e eu não a teria feito tão
bem: eu tinha recomendado a recuperação por ser menos invasiva, mas recuperação
deixa o mcap sem índice de mensagens e, pior, deixa o mecanismo vivo para toda
corrida futura, inclusive a do passo 7.

Como ficou: SIGINT **dirigido só ao `ros2 bag record`**, com janela própria de
30 s para ele fechar o arquivo sozinho, e só depois o grupo cai. O alvo é
escolhido por argv e reconfirmado por (pid, starttime, marca) logo antes do
sinal — as três primitivas novas (`acha`, `vivo`, `sinaliza_um`) entraram só na
**minha cópia** do `processos.py`, e há teste comparando função por função que
`sinaliza_grupos`, `sinaliza_marcados`, `_mata_se_ainda_for`, `classifica` e
`compara` continuam idênticos aos da etapa 5 — e que as etapas 4 e 5 **não**
ganharam as primitivas novas. Cópia é cópia; validador fechado é evidência
congelada.

E a regra que o dono fixou, que é a que dá sentido ao resto: o `reindex` entra
**só para preservar a evidência**, marcando **RECUPERADO**, e RECUPERADO **força
RC 1**. Recuperação não transforma encerramento defeituoso em corrida aprovada.
Para a corrida final valer, o bag tem de fechar naturalmente.

**Um erro meu que quase passou**, e fica registrado porque é da família dos
caros: escrevi a mensagem de erro com backtick dentro de aspas duplas —
`"(não achei o ``ros2 bag record`` marcado)"`. Em bash isso é substituição de
comando: a mensagem **executaria um gravador**. Peguei relendo antes de rodar, e
agora há uma varredura de backtick em linha de código.

**Provas desta sessão:** suíte inteira **1352 passed**, zero vermelho; 57 testes
do validador, incluindo os que provam que `sinaliza_um` **recusa** processo sem a
marca e starttime diferente (a trava que impede a finalização dirigida de ser um
`pkill` disfarçado). As duas pastas anteriores ficam **intactas**, e `a39962a`
não foi amendado.

---

## 📏 2026-09-24 (PC de dev) — TERCEIRA CORRIDA: O SINAL ESTAVA ERRADO, NÃO A JANELA

`~/etapa6/20260924_113332/`, `5391d0e`, **RC 1**. O conserto do manifesto
funcionou inteiro: `sha256sum -c SHA256SUMS` retorna **0** com 41 arquivos, e a
máquina de veredito se comportou como projetada — o `reindex` marcou
**RECUPERADO** e isso **forçou RC 1**, sem transformar encerramento defeituoso em
corrida aprovada.

**Mas o encerramento dirigido falhou, e não por pouco:** o SIGINT foi entregue
(`alvo 165731: sinalizado`) e o gravador ficou vivo as 300 esperas inteiras.

**Medi em vez de aumentar o tempo.** Quatro experimentos, sem Gazebo, sem pilha:

| sinal e alvo | saiu? | `metadata.yaml` |
|---|---|---|
| SIGINT no pid | não, ≥20 s | não |
| SIGINT no pid, com `--use-sim-time` | não, ≥20 s | não |
| SIGINT no **grupo** (o que o Ctrl+C do terminal faz) | não, ≥30 s | não |
| **SIGTERM no pid** | **sim, 0,42 s** | **sim** |

Ou seja: o `ros2 bag record` deste Jazzy **não responde a SIGINT**, de jeito
nenhum. Não era janela curta — 60 s ou 120 s não mudariam o mecanismo —, e não
era o `--use-sim-time`, que tinha sido minha primeira suspeita. Com SIGTERM ele
fecha em 0,42 s, escreve o `metadata.yaml` e o bag abre no `ros2 bag info`.

*Hipótese do mecanismo, não medida e não necessária para decidir:* o CLI `ros2`,
em Python, instala tratador próprio de SIGINT, que não roda enquanto a execução
está bloqueada no C++ do gravador; o SIGTERM não passa por esse caminho e alcança
o tratador do `rclcpp`.

**Levei ao dono em vez de trocar por conta própria**, porque o sinal era instrução
nominal dele. Autorizado, ficou: SIGTERM no alvo dirigido, janela de 30 s, e três
conferências que não existiam antes — o `launch.log` tem de registrar
`finished cleanly [pid N]` (o status de saída não dá para colher com `wait`: o
gravador é filho do `ros2 launch`, não do validador), nenhum processo do gravador
pode sobrar, e o `metadata.yaml` tem de ser dele, não do `reindex`.

**A política de grupo continua INT e depois KILL**, igual às etapas 4 e 5. Há
duas travas: uma compara **função por função** o `processos.py` desta etapa com o
da etapa 5 (`sinaliza_grupos`, `sinaliza_marcados`, `_mata_se_ainda_for`,
`classifica`, `compara`), e outra confere que a `lib.sh` não ganhou TERM nas
chamadas de grupo. Conferi que a primeira **morde**: perturbei uma linha de
`sinaliza_grupos` e ela reprovou.

**Um conserto no próprio teste, e vale registrar o porquê:** a comparação ia do
`def` até o próximo `def`, e engolia o que estivesse no meio — foi assim que ela
acusou diferença quando eu só acrescentei `TERM` ao `SINAIS`, que fica entre duas
funções. Pior que o falso positivo era o falso negativo que isso permitia: mexer
na função e compensar fora dela passaria. Agora ela corta na primeira linha de
topo depois do corpo.

Suíte inteira: **1354 passed**. As três pastas anteriores ficam intactas, e
`5391d0e` não foi amendado.

## 🧾 2026-09-24 (PC de dev, sem subir nada) — A PASTA CONTRADIZIA O ARQUIVO QUE ELA ASSINA

A auditoria da quarta corrida (`5cee221`, `~/etapa6/20260924_114704`) confirmou
tudo o que importava — manifesto de 40 arquivos fechando com `sha256sum -c` 0,
bag com 89 300 mensagens em 26,174 s abrindo no `ros2 bag info`, gravador
encerrado limpo sem `reindex`, nenhum processo marcado sobrando — e ainda assim
o passo 6 não podia fechar.

**O defeito:** `resultado.csv:17` declarava `0` linhas `ERROR/FATAL/died`,
enquanto o `launch.log:624` **assinado pelo mesmo manifesto** tinha cinco
`process has died ... exit code 1` (`heading_controller`, `placa_simulada`,
`compensador_rumo`, `path_follower`, `freeze_capture`). A contagem acontecia
antes do `limpa`; essas linhas nascem durante o teardown. Nada corrompido — mas
a pasta afirmava algo falso sobre um arquivo que ela própria assina, e é
exatamente o tipo de contradição que faz duvidar também do que está certo.

**O conserto: dois exames, três números.** Snapshot `launch_execucao.log`
tirado antes de qualquer sinal, e o `launch.log` final examinado **depois** do
`limpa`. O resultado passa a registrar (1) execução antes da limpeza, (2) total
do `launch.log` final assinado, (3) trecho após o snapshot de pré-limpeza.

**Por fronteira de POSIÇÃO, não por diff.** O recorte do trecho posterior usa a
quantidade de linhas do snapshot (`awk -F: '($1+0) > (n+0)'`). Comparação
textual anularia duas linhas de erro idênticas, e sumiria justamente a repetida.
O rótulo também é deliberado: **"após o snapshot"**, nunca "causado pelo sinal"
— o que se mediu foi posição no arquivo; atribuir causa a cada linha seria
afirmar mais do que a fronteira prova. Há teste travando a palavra.

**Os cinco encerramentos viraram dívida separada** (decisão 057): são falhas de
teardown, não erros durante a execução; **não** foram declarados aceitáveis para
hardware real; consertá-los alcança `robot_base/`, `robot_nav/` e nós existentes
— os pacotes que a 056 declara intocados —, então fica fora do gate desta etapa.
O critério de pronto é esses nós saírem com código 0. A 056 segue 🟡 proposta
até o passo 8.

Quatro travas novas no `test_valida_etapa6.py`: a ordem (snapshot → `limpa` →
exame final → manifesto), os três rótulos exatos, o recorte por posição, e os
quatro arquivos novos entrando no escopo assinado. Suíte focada da etapa 6:
**56 passed, 7 skipped**. `5cee221` e as quatro pastas ficam intactos — a quinta
corrida só sai com o diff auditado. O passo 7 permanece fechado.

## 🧮 2026-09-24 (PC de dev, GAZEBO headless, robô DESLIGADO) — QUINTA CORRIDA: 0 / 7 / 7, E O SÉTIMO ERA UM SEGFAULT

Corrida em `8515a25`, pasta `~/etapa6/20260924_132510`, **RC 0**. Zero
REPROVADO, zero RECUPERADO. Manifesto de **43 arquivos** com `sha256sum -c`
retornando 0; o bag abriu no `ros2 bag info` **sem `reindex`** (61 022
mensagens, 17,8 s, início em 0,002 s); os quatro artefatos novos
(`launch_execucao.log` e os três relatórios) entraram no escopo assinado; e o
resultado **concorda numericamente** com o `launch.log` que ele assina — que era
o ponto de tudo isto.

**Os três números deram `0 / 7 / 7`, e eu esperava `0 / 5 / 5`.** Os cinco
conhecidos (código 1) reapareceram iguais. Os dois a mais:

- `launch.log:631` — **`collision_monitor` morreu com código −11 (SIGSEGV)**,
  não 1. Na quarta corrida esse mesmo nó saiu `finished cleanly`. É
  **intermitente**, e é binário de prateleira do Nav2, não código nosso.
- `launch.log:463` — `collision_monitor` com `[ERROR] getTransform: ...
  extrapolation into the future. Requested time 18.501000 but the latest data
  is at time 18.500000`. Um milissegundo. Não existia na quarta corrida.

**Parei a corrida ali mesmo, com RC 0**, porque a regra combinada era essa:
contagem diferente da esperada preserva a pasta e para, já que essas linhas são
ANOTADO e o RC não as vê.

**A sequência resolveu a dúvida, e ela é do teardown:** linha 382 o gravador
fecha limpo → 383–408 o `signal_handler(SIGINT/SIGTERM)` chega aos nós → 459
`collision_monitor: Cleaning up` → 463 o erro de TF → 631 a saída −11. Os dois
achados novos vêm **depois** do sinal geral e **dentro** do `Cleaning up`. Logo
`0 / 7 / 7` descreve a corrida corretamente, e execução, integração e limpeza
sem órfãos seguem aprovadas.

**Eu havia proposto mover a fronteira do snapshot** para depois de o gravador
fechar, achando que a linha 463 fosse erro com a pilha de pé. A sequência mostra
que não: ela já cai do lado certo. Proposta descartada — não mudaria nenhum dos
três números. Fica registrado porque o raciocínio errado também é evidência.

**A 057 foi ampliada, não suavizada**: virou "saídas **não limpas** no
teardown", com os **seis** nós (cinco código 1 + o `collision_monitor` −11,
intermitente), o erro de TF registrado **sem** afirmar que causou o segfault,
Nav2 **1.3.12 instalado / 1.3.13 candidato** (sem correção nominal para este
caso — não se troca versão no meio da prova) e a ausência de backtrace
(`systemd-coredump` não instalado aqui). Tirei de lá as palavras "cosmético" e
"ruído de teardown": **isto é dívida real e potencialmente relevante em
hardware** — no robô, o caminho de saída é o que zera atuador, e sendo
intermitente não dá para ser descartado por uma corrida que passou. Critério de
pronto: os seis com `finished cleanly`, nenhum erro depois do início do
encerramento, e `0 / 0 / 0`.

**Correção histórica no `PLANO_ETAPA6_ROBO3.md` §238**: onde se lia "zero linha
ERROR/FATAL no `launch.log`", passa a ser "zero **no snapshot anterior à
limpeza**". A mesma frase aparece na entrada deste diário de 24-09 sobre a
primeira corrida (linha ~10326) — não reescrevi o registro passado, que é o que
eu de fato achei na hora; vale esta correção para as duas.

Sem sexta corrida. `8515a25` e as cinco pastas preservados. O passo 7 continua
fechado.

## 🎯 2026-09-24 (PC de dev, sem subir nada) — O CONTRATO DO TERCEIRO CRITÉRIO, ANTES DO PRIMEIRO TESTE

O passo 7 continua fechado; o que se fechou hoje foi o **contrato** dele, que é
o que decide o validador antes de existir uma linha dele.

**A decisão do dono:** observar no **consumidor final**,
`/hoverboard_base_controller/cmd_vel` — depois do modelo de atuador —, e
transformar "não nulo" em **"acima do patamar vivo da placa simulada"**:

```
ve = v - wz·bitola/2 ;  vd = v + wz·bitola/2 ;  comando_efetivo = max(|ve|,|vd|)
patamar = deadband_speed · escala_real · raio
```

**Conferi os números na captura viva da quinta corrida** em vez de aceitar a
conta: `/placa_simulada` traz `modelo: medido`, `deadband_speed` 100,0,
`escala_real` 0,0372, `raio` 0,0825 → **patamar 0,3069 m/s**, igual ao que o
dono calculou. E o grafo confirma o sentido do tópico
(`placa_simulada.py:184-186`: publica em `/hoverboard_base_controller/cmd_vel`,
assina `/cmd_vel_bruto`).

**Um achado que só apareceu por conferir:** a `bitola` viva é **0,32**, e o
default do nó é **0,270** (`placa_simulada.py:177`). Se o teste redigitasse o
número — ou lesse o default —, `ve`/`vd` sairiam errados e o critério mediria
outra coisa. É o melhor argumento concreto para a regra "consulta, não
redigita", que agora está escrita no plano.

**E uma propriedade do modelo que precisa estar dita**, senão o critério é lido
como mais forte do que é: no modelo `medido`, comando entre 1 unidade e
`deadband_speed` é **multiplicado** por `k = deadband_speed/mx`
(`placa_simulada.py:408-411`), então a saída cai **exatamente** no patamar.
Medido na saída, o teste é na prática "**o comando não foi engolido**" —
sobreviveu ao corte `mx <= 1.0` e ao zeramento por latência. É o que se quer
provar do caminho, mas **não** afirma que o Nav2 pediu o bastante (isso é o
`/cmd_vel_bruto`, diagnóstico). E é a igualdade exata com o patamar que torna a
tolerância de `1e-3` necessária, não cosmética.

Contrato escrito no `PLANO_ETAPA6_ROBO3.md` **§4.6.1** (novo) e na **decisão
056 §4.1**, com o "fora de alcance" da 056 corrigido: continua fora a zona morta
**real do robô 3** — o critério valida **apenas a placa simulada herdada do robô
2**. Também entrou no plano a exigência de **registrar a pose inicial** (sem
ela, não se prova que o objetivo não nasceu dentro da tolerância) e a recusa
explícita de um quarto critério de deslocamento.

Nenhum código escrito. O passo 7 abre quando o dono pedir.

## 🚗 2026-09-24 (PC de dev, GAZEBO **COM JANELA**, robô DESLIGADO) — O ROBÔ 3 RECEBE OBJETIVO E ANDA — E A PLACA HERDADA COMEÇA O ARCO

Duas corridas **exploratórias**, em `~/etapa7-explora/`. 🔴 **Nenhuma delas fecha
o passo 7**: o contrato do §4.6.1 exige três critérios medidos, e aqui o
instrumento foi o olho do dono com Gazebo e RViz abertos. O juiz
(`tools/valida_etapa7/julga.py`) ficou estacionado em `f2f8f3e`, com os 77
vermelhos de evidência inválida ainda abertos.

**Por que sair da ordem:** o dono pediu a corrida antes do juiz — ver o robô
andar vale mais, agora, do que refinar quem julga. Estava certo: em duas horas
apareceram quatro defeitos que nenhum teste de bancada teria mostrado.

### Primeira corrida (`20260924_154659`) — a minha falhou, a dele andou

O wrapper esperou 180 s e **derrubou tudo sem mandar objetivo**, com os três nós
do Nav2 **`active [3]`** no `lifecycle.txt`. A causa é minha e é besta:
`ros2 action list --spin-time 2` — **este Jazzy não aceita `--spin-time` no
`action list`** (só `-t` e `-c`). O comando saía com código 2, o `2>/dev/null`
engolia a mensagem, a condição nunca passava e o `tf2_echo` jamais rodou.
**Erro descartado é erro que mente**, e este mentiu por 180 s.

O que se mexeu na tela foram **dois goals que o dono mandou pelo RViz**, ambos
`Goal succeeded`. O `seguidor_*.csv` guardou:

| medida | valor |
|---|---|
| amostras / duração | 532 em **32,75 s** simulados |
| percorrido / líquido | **7,003 m** / **5,714 m** |
| estado / modo | `seguindo`/`normal` o tempo inteiro — **zero desencalhe** |
| velocidade alvo | média **0,491 m/s** (teto do perfil: 0,5) |

**Quatro defeitos, os quatro registrados porque custam caro de reachar:**

1. `--spin-time` inválido no `action list` (acima);
2. **o robô NÃO nasce em (0,0), nasce em (2,0; 5,0)** — o default `x=0 y=0` é do
   `sim_robo3.launch.py`, mas a `pilha.launch.py` passa outra pose. Meu goal
   "1 m à frente" (`x=1, y=0`) era, na verdade, **~5 m atravessando o mapa**. A
   corrida teria medido isso chamando de um metro;
3. `ros2 topic echo --once` deste Jazzy **fecha a mensagem com `---`**, que em
   YAML abre um segundo documento: `yaml.safe_load` recusa com
   `ComposerError: expected a single document in the stream`. O wrapper abortaria
   antes de mandar o objetivo (agora é `safe_load_all`, com **exatamente um**
   documento exigido — duas poses no fluxo falham em vez de adivinhar qual é);
4. a saída antecipada **pulou o encerramento dirigido do gravador**: sobraram
   **1,7 GB** de `bag_0.mcap` **sem `metadata.yaml`**, que o `ros2 bag info` não
   abre. Agora `fecha_gravador` é função idempotente dentro do
   `trap 'fecha_gravador; limpa' EXIT`.

Mais dois consertos de referencial: o objetivo passou a ser **relativo à pose
viva** (`goal = pose + 1 m no rumo atual`, yaw tirado do quatérnio, orientação
preservada, conferido contra yaw 0/90/180/−90), e `localizacao:=fixa` virou
**explícita** na chamada — o `/Odometry` está em `odom` e o goal vai em `map`, e
eles só coincidem porque `map→odom` é identidade na localização fixa. Depender
desse default repetiria exatamente o erro do spawn.

### Segunda corrida (`20260924_160148`) — objetivo automático, `SUCCEEDED`

| | |
|---|---|
| pose inicial lida | **(2,000; 5,000)**, yaw 0 |
| objetivo calculado | **(3,000; 5,000)** — 1 m à frente, orientação preservada |
| resultado da ação | `Goal accepted` → **`SUCCEEDED`** (425 feedbacks) |
| pose final | (2,778; 4,912) → **0,2387 m do alvo** |
| deslocamento / duração | **0,783 m** em **~3,3 s** simulados |
| desvio lateral máximo | **9,56 cm** para a direita; rumo foi a **−10,4°** e voltou a **+7,9°** |

⚠️ Ele encerrou ao **entrar na tolerância de 0,25 m**, não ao parar no centro —
e essa tolerância é **herdada do robô 2**. "Chegou" aqui é "entrou no raio".

**Defeito meu que a própria evidência delatou:** o `trajeto.csv` saiu **vazio** e
o wrapper reprovou honestamente ("nenhuma amostra"). A navegação durou 3,3 s
simulados e cada volta do meu laço de amostragem gasta até 10 s no
`ros2 topic echo --once` — acabou antes da primeira amostra. O conserto não é
apertar o laço: é **ler do bag / do `seguidor_*.csv`**, que já têm tudo. Fica
para mudança separada.

### A leitura OFFLINE do bag, e ela corrige a hipótese que eu tinha

A pergunta do dono foi: *o Nav2 dele não tem relação com o do robô 2?* Tem —
**é o mesmo**. O perfil 3 troca geometria, `footprint`/`padding`, os polígonos e
tempos do monitor de colisão, os derivados geométricos do seguidor e o mux; mas
`perfil_robo3.yaml:54+` declara **herdados provisórios** a velocidade, o
lookahead, a tolerância de chegada, os pesos do planner/suavizador e o
`desired_linear_vel` — este último com a origem escrita: *"robô 2: controlador do
Nav2 sintonizado para a dinâmica do robô 2"*. Fecham nas etapas 8 e 10.

Eu atribuí o arco ao controlador herdado. **O bag desmente a ordem dos fatos.**
Na janela do objetivo, 68 amostras comparando `/cmd_vel_bruto` (o pedido) com
`/hoverboard_base_controller/cmd_vel` (o entregue):

- o pedido começou **exatamente** em `v=0,500, wz=0` — reta pura;
- a placa **segurou zero por ~0,30 s** (a `latencia`);
- e então entregou **`v=0,3668, wz=−0,3746`** — curva à direita que **ninguém
  pediu**;
- **só depois** o controlador passou a pedir `wz` positivo, corrigindo;
- o pedido terminou em 38,60 s e a **saída da placa continuou até 39,45 s**
  (o `atraso_desliga`);
- entrada e saída divergiram em **todas** as 68 amostras.

Ou seja: **o arco começou no modelo simulado do atuador, não na decisão de
navegação.** E isso está escrito no código, sem surpresa nenhuma —
`placa_simulada.py:163` injeta `curvatura_frente −0,817 1/m` (raio 1,22 m,
medida no robô **2**), e a própria placa avisa no log ao subir
(`placa_simulada.py:226`): **"Não espere reta deste robô."** O
`sim_robo3.launch.py:97-100` admite junto que `rendimento_giro` 0,80 também é do
robô 2 — *"bitola diferente e quatro apoios em vez de três mudam quanto do giro
pedido o chão entrega… é dos primeiros a remedir na bancada"*.

**O que isto prova e o que NÃO prova.** Prova que a placa transformou o comando
e iniciou o desvio. **Não** separa quanto dos 9,56 cm finais é do modelo da placa
e quanto é dinâmica de contato do chassi 3 — para isso faltaria uma corrida
contrafactual com `placa:=ideal` (o modo em que o nó vira fio) ou instrumentação
de roda. Fica declarado como não sabido.

### O que fica

O chassi e o simulador são do robô 3; **boa parte do "cérebro fino" de navegação
ainda é sintonia do robô 2**, e agora sabe-se que **o modelo do atuador também
é** — e que ele, sozinho, já basta para tirar o robô da reta. Nada disso é
notícia ruim para uma primeira corrida: 9,56 cm corrigidos e chegada limpa.

🔴 **E nada disso libera hardware.** O que foi liberado é outra simulação. A
pilha continua recusando `robo:=3 sim:=false` de propósito, a fronteira física
não foi validada, e o primeiro movimento em hardware segue sendo **auditar o
notebook com o robô desligado** (`docs/ROTEIRO_ETAPA6_PRECONDICAO.md`).

---

## 🔀 2026-09-25 (PC de dev, robô e lidar DESLIGADOS) — A `main` ENTRA NA ETAPA 6, A 058 VEM JUNTO, E A JUNÇÃO QUEBRA O AUDITOR

Sessão só de integração, sem Gazebo e sem hardware. Três frentes de 24-09
viviam separadas: a etapa 6/7 nesta branch, a prova parada do Mid-360 na
`main` e a decisão 058 na branch `livox-config-maquina-sensor`.

**1. Merge da `main` (`64c0865`).** Backup antes, em
`backup/etapa6-pre-merge-main` → `d52b5da`. As branches tinham DIVERGIDO (31
commits daqui, 2 novos lá), então foi merge de verdade. Único conflito:
`ESTADO_PROJETO.md`, no cabeçalho e no corpo — resolvido mantendo as duas
narrativas inteiras. O `DIARIO.md` juntou sozinho; conferido por contagem que
nada se perdeu (10 197 da base + 566 daqui + 239 de lá = 11 002). Os dados de
`docs/dados/2026-09-24-robo3-lio/` passaram no `sha256sum -c`. Nenhum código.

**2. Cherry-pick do `279f408` (`6dc13f1`), a decisão 058.** Três conflitos no
`ESTADO_PROJETO.md`. O texto de lá tinha contexto que já não vale aqui ("a
branch da etapa 6 não foi tocada", "auditar o NUC"), então não foi aceito
inteiro: ficou o estado atual da etapa 6 (auditoria do NOTEBOOK) e entraram o
bloco da 058 e a troca do `cmp` pela conferência da cópia ativa.
`test_config_livox` 15 ✅ e `robot_base` 127 ✅.

**3. O defeito de composição.** Cada linha estava certa sozinha; juntas, não.
O `bin/audita-livox` (só existe nesta branch) comparava o JSON de runtime com
`robot_base/config/MID360_config.json` — exatamente o arquivo que a 058
removeu. Numa máquina montada como a 058 manda, ele diria **sempre**
`REPROVADO "sem o versionado …"`. Os 23 testes dele passavam porque o fixture
escrevia o próprio JSON universal: testavam uma árvore que não existe mais.
Achado lendo as referências ao arquivo renomeado depois do cherry-pick, não
por teste.

**4. Decisão 059 e correção.** Decisão escrita antes do código: sem JSON
universal, "certo" passa a ser "o template materializado com os próprios IPs
do runtime", com host igual nos quatro campos, casando com exatamente um
perfil, e sensor válido para a rede desse perfil; a checagem 8 lê o host do
runtime. As regras são IMPORTADAS do `prepara_config_livox.py`, não
reescritas. O auditor continua sem alegar nada sobre o sensor.

- Vermelho antes: com o fixture na árvore da 058, a máquina certa dava
  `[REPROVADO] config de rede sem o versionado` — 21 de 37 vermelhos.
- A revisão pegou um segundo buraco antes do commit: `host_net_info` como
  lista ou `lidar_configs[0]` como texto derrubavam o conferidor com
  `AttributeError`, e o bash chamava isso de INCONCLUSIVO. JSON quebrado
  passando por "não deu para provar" é o tipo de verde falso que a gente
  combate; dois testes vermelhos, depois checagem de tipo.
- Verde depois: `tools/audita_livox` 39 ✅. Suíte da raiz: **zero regressões;
  77 falhas deliberadas e preexistentes em `tools/valida_etapa7`** (juiz
  estacionado em `f2f8f3e`); 1434 passaram.
- Rodado de verdade neste PC (só leitura): 7 APROVADO (`nuc`, `.2/.158`,
  "sensor não consultado"), 8 INCONCLUSIVO "cabo fora?" — certo, não há
  interface na rede do lidar aqui.
- Um teste antigo saiu de propósito: "`.169` no runtime reprova". Sob a 058,
  `.169` é sensor válido para o `notebook`; offline não dá para saber qual
  unidade está no cabo.

**Lição de método.** Merge e cherry-pick sem conflito de texto não querem dizer
que as mudanças funcionam juntas. Depois de trazer uma mudança que renomeia ou
remove arquivo, procurar quem ainda o referencia **antes** de declarar a
integração pronta.

🔴 **Não prova hardware.** Nada foi ligado; nada foi enviado ao GitHub ainda.

## ⚖️ 2026-09-25 (PC de dev, robô, lidar e Gazebo DESLIGADOS) — OS 77 VERMELHOS DO JUIZ FECHAM, O PASSO 7 CONTINUA ABERTO

Sessão só de código offline, em `tools/valida_etapa7`. O juiz
(`julga.py`, função pura) estava estacionado em `f2f8f3e` com 77 vermelhos
deliberados: evidência inválida que ele aprovava calado, reprovava pelo motivo
errado ou com que estourava. Foram fechados em cinco grupos, um de cada vez,
cada um revisado antes do commit:

| grupo | commit | o que passou a ser recusado | `valida_etapa7` (passam/falham) | raiz (passam/falham) |
|---|---|---|---|---|
| G1 | `708570f` | `deadband_speed`, `escala_real`, `raio`, `bitola` zero, negativos, não finitos, bool ou texto | 73 / 49 | 1462 / 49 |
| G2 | `9418fe0` | `xy_goal_tolerance` inválida | 87 / 35 | 1476 / 35 |
| G3 | `9706536` | `t`, `v`, `wz` não finitos ou bool | 103 / 19 | 1492 / 19 |
| G4 | `e613ad9` | janela sem campo, não finita ou invertida, conferida antes de qualquer amostra | 116 / 7 | 1505 / 7 |
| G5 | `71dbfd5` | item não dicionário ou amostra do tópico final malformada, em qualquer posição | **124 / 0** | **1513 / 0** |

Três escolhas que valem registrar:

- **Janela `[t, t]` é válida (G4).** A janela é fechada; recusar a igualdade
  criaria uma duração mínima que o contrato nunca definiu. Ficou um teste de
  caracterização, verde antes e depois.
- **Amostra quebrada fora da janela também reprova (G5).** Amostra malformada
  é falha da coleta, não da corrida: nem o recorte temporal nem uma amostra boa
  ao lado a escondem. Isso reverteu de propósito a fronteira deixada no G3
  ("v/wz só dentro da janela"), com um teste vermelho explícito antes do
  código. O detalhe diz índice e campo (`faltou v em amostra 2`), porque com
  milhares de amostras "alguma está quebrada" não é achável.
- **Falha rápida.** O detalhe cita a primeira amostra e o primeiro campo
  inválidos; os outros não são listados.

A suíte da raiz só coleta com o ROS carregado
(`source /opt/ros/jazzy/setup.bash` e `install/setup.bash`); sem isso para na
coleta com `PackageNotFoundError`.

🔴 **O que isto NÃO fecha.** O passo 7 continua **ABERTO**: nenhuma corrida
foi julgada pelos três critérios. O juiz é puro e ainda não está ligado à
coleta executável; o `d52b5da` (coleta do trajeto pelo CSV do seguidor)
continua não executado. Próximo: integrar a coleta ao juiz, prová-la offline e
só depois pedir autorização para a corrida no Gazebo. Nada foi enviado ao
GitHub.

## 🔗 2026-09-25, tarde (PC de dev, robô, lidar e Gazebo DESLIGADOS) — A COLETA LIGADA AO JUIZ, SÓ OFFLINE

Depois do 124/0 do juiz, a ligação corrida → evidência → `avalia`, pela
decisão **060** (`14739b1`), escrita antes dos testes. Cada peça teve teste
vermelho antes do código:

| peça | vermelho | código | prova |
|---|---|---|---|
| montador `monta.py` | `3f6d8ae` (28, todos por módulo ausente) | `8071a19` | 28/0; três mutações pegas (header, grafo textual, nome `goal_checker` fixo) |
| extrator `le_bag.py` | `6a484e4` (6) | `f702116` | 6/0; duas mutações pegas; bag real de `160148`: 146 amostras finais, 146 brutas, `status=None` |
| `bin/valida-etapa7` + `corrida.py` | — | `b11f966` | 28 testes (offline + travas estáticas do wrapper); `bash -n` |

Totais: `tools/valida_etapa7` **186/0**; suíte da raiz **1575/0**.

Achados no caminho: o `header.stamp` do tópico final fica de 1 a 35 ms antes
da gravação (é herdado do comando de entrada, `placa_simulada.py:431`), o que
confirma a escolha do instante do bag; e o mcap de `160148` não tem índice de
mensagens (aviso do `rosbag2`), o que não afeta nada porque o montador ordena
o status e o juiz não depende da ordem das amostras.

Custo: o dono achou desproporcional um dia inteiro no instrumento, e com razão
— o escopo foi congelado no meio da tarde. O `b11f966` foi commitado e enviado
sem a revisão do revisor, a pedido do dono no fim do dia.

🛑 **Parou aqui.** O `bin/valida-etapa7` nunca rodou. Recomeçar: revisar o
`b11f966`, pedir o "pode" e rodar a corrida no Gazebo (robô desligado). O
passo 7 continua **ABERTO**.

## 🔍 2026-09-28 (PC de dev, robô, lidar e Gazebo DESLIGADOS) — A REVISÃO DO `b11f966`: QUATRO DEFEITOS, DOIS DE FALSA APROVAÇÃO

O dia começou onde o 25-09 parou: revisar o `b11f966`, enviado sem revisão,
antes da primeira corrida do `bin/valida-etapa7`. Nada subiu: nenhum ROS
vivo, Gazebo ou robô. O registro técnico completo está na decisão **060 §6**.

A revisão achou quatro defeitos. Dois deles podiam **aprovar corrida ruim**:

| ponto | defeito | correção |
|---|---|---|
| A | `SUCCEEDED` aos 61 s aprovava; o wrapper cortava por um `/clock` lido antes do goal e só anotava | item novo do juiz, `7.1 a ação fechou em até 60 s simulados`, em **ns inteiros** e sem folga; o wrapper não corta mais por relógio, só o watchdog de parede (reprova) |
| B | o alvo enviado era o `%.4f`, o julgado era o completo | x/y saem como escalar YAML, o mesmo texto do `poses.yaml` |
| C | RC do `julga` ignorado; saída parcial ou veredito estranho escapavam | `confere_julgamento`: conjunto exato dos 13 nomes, vereditos e RC coerente; senão uma linha conhecida REPROVADO e nada do TSV passa |
| D | o manifesto assinava o `console.txt` e nascia inválido; sem `sha256sum -c` | padrão do `valida-etapa6`, mais: escopo com `pipefail` e conferido contra os artefatos de prova antes de assinar |

Método: vermelho antes do código, um commit cada; mutação depois de cada
conserto; o revisor liberava cada passo. Os trechos do wrapper foram
**executados** em bash com calços (goal como `sleep`, `corrida.py` falso,
`sha256sum`/`find`/`sort` que falham sob comando), não só lidos.

O que deu errado no caminho, e ficou registrado porque é o que ensina:

- **Eu propus uma folga de 1e-9 s** no teto, porque 60 s exatos pelo montador
  davam `60.00000000000001`. O revisor mostrou que ela aprovaria **60 s + 1 ns**:
  a fonte já é inteira, e a tolerância era artificial. Virou ns inteiros, com o
  caso `60 s + 1 ns` como teste decisivo.
- **A primeira versão do A transformou o corte do wrapper em REPROVADO** — e o
  corte era aproximado: lido antes do goal, ele reprovaria uma ação de 59 s
  aceita tarde. Saiu inteiro; o teto ficou só com o juiz.
- **Meu vermelho do montador usou o instante errado de aceite** (a linha
  ACCEPTED, não o `goal_info.stamp`): o "60 s exatos" era 60,001 s.
- **`repr` quase entrou no B**: `1e-05` é **texto** para o YAML 1.1 que o
  `send_goal` usa. Achado lendo o `send_goal.py`, antes do código.
- **Um calço fraco escondeu um teste inútil no D**: o `find` falso imprimia
  lista curta, e o teste passava pela falta de artefatos, não pelo RC — a
  mutação "sem `pipefail`" sobreviveu. O calço passou a fazer o trabalho
  inteiro e só então falhar.
- Dois erros de literal nos testes (ordem dos itens do juiz; nome do `.mcap`),
  corrigidos e ditos nos commits.

Números: `tools/valida_etapa7` **186/0 → 281/0**; suíte da raiz
**1575/0 → 1670/0**. Catorze commits locais (`417dbff` … `80df9f6`, mais o
da documentação), sem push até a revisão final.

🛑 **Parou aqui.** O `bin/valida-etapa7` **ainda não rodou**. Próximo: uma
revisão offline única dos commits de hoje; sem bloqueador capaz de falsa
aprovação, pedir o "pode" e rodar a corrida no Gazebo headless (robô
DESLIGADO). O passo 7 continua **ABERTO**.

## ✅ 2026-09-28, tarde (PC de dev, GAZEBO HEADLESS, robô e lidar DESLIGADOS) — O PASSO 7 FECHA: TRÊS CORRIDAS, UMA CANÔNICA

A revisão offline final dos 14 commits não achou bloqueador capaz de falsa
aprovação, e o dono deu o "pode". Código em `81bf0dc`, árvore limpa. O dono
saiu para almoçar e liberou as corridas com uma regra: **limpar TUDO de uma
corrida antes da outra**. Antes de cada uma e depois da última, zero processo
ROS/Gazebo, zero marca, zero segmento DDS, domínio 49 sem nós.

| corrida | o que houve |
|---|---|
| `114420` | parou no **build**. A 058 renomeou `MID360_config.json` para `.template.json`, mas o `build/` deste PC ainda tinha o symlink de `--symlink-install` para o nome antigo, pendurado; o `glob('config/*')` do `setup.py` o pegou. Primeiro build aqui desde a 058 — a suíte não roda `colcon build`, então nada acusou antes. Apagado só o link (o único pendurado), com o ok do dono |
| `114620` | **APROVADA nos 13 itens, mas não canônica**: o `joint_state_broadcaster` estourou o timeout de 5 s na ativação, o spawner morreu, `/joint_states` ficou com 0 mensagens. Não mexe nos três critérios, mas a pilha não subiu nominal — e o wrapper não vê isso |
| **`114902`** | **CANÔNICA**: 13/13, subida nominal (`/joint_states` 257 mensagens) |

A canônica: `SUCCEEDED` em **3,342 s simulados**; final a **0,0906 m** do alvo
(tolerância viva 0,25 m; partida a 1,0 m); **65** amostras na janela, maior
comando efetivo **0,4268 m/s** acima do patamar vivo **0,3069 m/s** no
consumidor final; manifesto de 41 arquivos conferido também de fora. No
teardown, só os cinco `exit code 1` conhecidos da 057; nada antes dele.

Decisões do dono no fechamento:

- a falha do broadcaster é **dívida separada de inicialização**, ao lado da
  057 e não dentro dela; **sem** verificação nova no wrapper por ora;
- a `114620` fica registrada como aprovada mas não canônica.

Um número corrigido na documentação: o revisor citou 256 mensagens em
`/joint_states`; o `metadata.yaml` assinado da `114902` diz **257** (linha
559), e é esse que vale.

⚠️ **Para notebook e NUC:** com `build/` anterior à 058, o primeiro build
bate no mesmo link pendurado. `find build -xtype l` mostra; apagar o link.

🔴 **O que NÃO prova:** o patamar é o da placa simulada herdada do robô 2;
não mede a zona morta real do robô 3, e é simulador.

**Passo 7 FECHADO.** Próximo pelo plano: o passo 8 (decisão 056 → aplicada,
gate de não regressão do robô 2, §6 do `PLANO_ETAPA6_ROBO3.md`).

## 🏁 2026-09-28, tarde (PC de dev, GAZEBO HEADLESS, robô e lidar DESLIGADOS) — PASSO 8: O GATE DO ROBÔ 2 PASSA, A 056 VIRA APLICADA, A ETAPA 6 FECHA NA BRANCH

O passo 8 do `PLANO_ETAPA6_ROBO3.md` é o gate de não regressão do robô 2 (§6),
quatro itens. Evidência versionada em `docs/dados/2026-09-28-etapa6-passo8/`
(README com os números copiados dos relatórios).

- **(a) diff contra `1f49981`** — **não passou como estava escrito**: oito
  arquivos fora da lista permitida, seis deles em `robot_base/`. Pela cláusula
  do gate ("se um arquivo do robô 2 precisar mudar, o passo para e volta ao
  dono"), parei e levei a lista com a origem de cada um. Decisão do dono:
  manter a referência `1f49981` (trocá-la esconderia o histórico que o gate
  audita) e aprovar **nominalmente** as oito exceções — os seis da decisão 058
  (`README.md` da raiz, `MID360_config.template.json`, `config/README.md`,
  `livox_host_profiles.json`, `test_config_livox.py`, `setup_livox.sh`), o
  docstring do `robot_base/launch/base.launch.py` e a coleta de testes do
  `pytest.ini`. Qualquer outro caminho continua reprovando. Os da 058 mudam a
  preparação do Livox real e **não** são provados pelo (c) nem pelo (d).
- **(b) suíte**: **1670/0** no estado final (com `718ac0f` e esta documentação), piso 1262.
- **(c) árvore de nós do robô 2 igual byte a byte** entre `1f49981` e
  `f2bb02c`, `sim:=true` (23 itens) e `sim:=false` (13). Instrumento novo,
  `tools/gate_robo2/lista_nos.py` (`718ac0f`): percorre a launch sem executar
  nada, expande includes/timers/handlers, avalia condições. Dois cuidados que
  decidiram a validade: **cada commit contra o próprio build** (dois worktrees
  com `colcon build` próprio — avaliar a launch antiga contra o `install/` de
  hoje daria "igual" por construção), e **mutação antes de confiar no igual**:
  controle igual; `xy_goal_tolerance` no `share/`, parâmetro a mais na launch e
  remapeamento do `twist_mux` dão diferente. A primeira comparação deu
  diferente por três coisas do instrumento, não da pilha (aviso da launch no
  stdout, caminho do worktree — inclusive 2× dentro do URDF, 6 caracteres —, e
  carimbo da pasta do bag); normalizadas só essas, igual.
- **(d) corrida do robô 2 no Gazebo**, `bin/valida-etapa4 robo2-gazebo 6.24
  3.51`, domínio 41: RC 0, parâmetros iguais à baseline v2 sem permissão,
  chegada. Conferido além do wrapper, contra a corrida que fechou a etapa 4: o
  "em 120.0 s" do relatório é o teto do instrumento nas duas; a primeira
  entrada no raio de 0,25 m, lida do CSV, foi **28,4 s** (referência 29,55 s);
  antes do encerramento, zero morte e um único `ERROR` (o shader do RViz);
  depois, os cinco `exit code 1` da 057, iguais na referência. Subida nominal.
  O `bin/valida-etapa4` não assina a pasta: o manifesto dela foi feito
  **depois**, por mim, e está versionado fora dela
  (`docs/dados/2026-09-28-etapa6-passo8/item_d_…SHA256SUMS`).

Limpeza total conferida antes de cada Gazebo, como o dono pediu.

**Decisão 056 → APLICADA** (§6 dela, com as provas dos passos 6, 7 e 8).
**Etapa 6 FECHADA na branch `etapa6-pilha-robo3`.** O merge na `main` é passo
separado, do dono. Dívidas que continuam abertas: 057 (teardown) e a ativação
intermitente do `joint_state_broadcaster` (060 §6.6).

🔴 **O que NÃO prova:** hardware, desempenho, a zona morta de qualquer robô, e
a preparação do Livox real que a 058 mudou.

## 🔴 2026-09-28, fim da tarde (PC de dev, GAZEBO HEADLESS, robô e lidar DESLIGADOS) — SUBIDAS DA 061: O SIGSEGV VOLTA E O BACKTRACE APONTA O PUBLISHER DESMONTADO

Retomada depois de **queda de luz** (o PC religou; `/dev/shm` zerado, mesmo
efeito do reinício planejado). Conferido antes: nenhum processo ROS/Gazebo,
0 `fastrtps*`, 0 marca, árvore limpa em `e55c8f0`.

- **Ensaio `144822`** (`bash bin/subidas-robo3 1`): nominal em 38,2 s,
  teardown limpo, ESTÁVEL 1/1. Resíduo depois: zero.
- **Bateria `145005`** (`… 20`): subida 1 nominal em 23,6 s e **SIGSEGV do
  `collision_monitor` no teardown**, 36 órfãos recuperados pela 061 §2.3.2.
  Parada pela regra do dono. Como a subida 2 já estava lançada, SIGINT no
  grupo do script: a limpeza dela aprovou, mas o `tee` morreu junto (console
  cortado, sem veredito) e o amostrador ficou órfão — encerrado por PID.
  **Fracasso do jeito de parar**, registrado na 061 §6. Conta só a subida 1.
- **Backtrace** do crash das 14h11 (Apport, bateria `141047`), tirado com
  `gdb` do CoreDump: `cmdVelInCallbackStamped → process →
  PublisherBase::get_subscription_count()` com `this = 0x10`. O dono leu o
  fonte do Nav2 1.3.12: `on_cleanup()` zera `collision_points_marker_pub_`.
  Causa imediata = publisher desmontado; o erro de TF anda junto mas não está
  no caminho. Ponto aberto: o executor é single-threaded — explicar como a
  callback roda depois do cleanup antes de escolher a correção (057, adendo).

Evidência: `docs/dados/2026-09-28-subidas-robo3/` (`bateria_20260928_145005/`
com NOTA e SHA256SUMS, `apport_collision_monitor_141047/`,
`sigsegv_nos_launch_logs.txt`). Nada de push. Nenhuma outra bateria até a
correção.

🔴 **O que NÃO prova:** a taxa do SIGSEGV (1 subida medida na bateria), nem
que a correção proposta resolve; nada de hardware.

## 🔴 2026-09-28, noite (PC de dev, robô, lidar e Gazebo DESLIGADOS) — O SIGSEGV REPRODUZIDO FORA DA PILHA; A CONSULTA DE NÓS NÃO ERA LEITURA

- **Fonte lido** (versões instaladas, por tag): o preshutdown roda na thread
  de sinais do rclcpp enquanto o executor segue; a espera de TF do
  `process()` só sai com `rclcpp::ok()` falso, depois do cleanup. O
  intervalo de ~100 ms é a espera do `~Bond` com o executor preso. Mutex
  segurado rejeitado (deadlock). 1.3.13 e `main` têm o mesmo código (057).
- **Reprodutor** (`tools/repro_cm_sigsegv/`, `e346af3`): só o nó sob gdb,
  domínio 53. **Tentativa 1 = vermelho**, mesma pilha e `rdi = 0x10`.
  Fracasso do instrumento: o classificador automático errou em dois
  critérios e a varredura acusou o próprio script — classificado à mão, a
  tentativa parou antes da limpeza. Não rodei a 2 nem a 3.
- **Recuperação do SHM:** a consulta `ros2 node list` removeu 6 arquivos
  (portas com `_el`). O dono tirou a consulta do gate; o `shm_recupera.py`
  ganhou reconferência interna só por `/proc` (`e75a13b`, teste antes). Os
  outros 6: 2 pelo `shm clean`, 4 pela remoção controlada. Zero no fim.

Evidência: `docs/dados/2026-09-28-repro-cm-sigsegv/` (`PROCEDENCIA.md`).
Nada de push.

🔴 **O que NÃO prova:** que a correção funciona (não há correção), nem a taxa
do SIGSEGV na pilha; e o reprodutor usa `transform_tolerance` 30 s e não tem
bond. Hardware continua bloqueado; overlay não decidido.

## 🟢 2026-09-28, noite (PC de dev, GAZEBO + RVIZ, robô e lidar DESLIGADOS) — O ROBÔ 3 FAZ O PERCURSO; A SEGUNDA PORTA ACIONA O STOP

O dono interrompeu a sequência documental da 061 para ver o robô andar. Antes
da sessão, `bash bin/subidas-robo3 1` (`20260928_155545`) deu uma subida
nominal: Nav2/TF em 29,2 s, controladores ativos, 64 mensagens de
`/joint_states`, `collision_monitor` limpo e zero resíduo.

Depois subiu a pilha com Gazebo e RViz no domínio 50, e o dono enviou pelo
RViz o objetivo `(10,5034; 6,6586)`, yaw `1,48406 rad`. O robô partiu de
`(2,000; 5,000)`, percorreu 13,524 m e o Nav2 declarou `SUCCEEDED` em ~57,1 s.
Chegou a 0,245 m no instante do sucesso e assentou a 0,105 m do alvo.

A observação do dono — "só na entrada da 2 porta ele foi meio burrinho" —
aparece nos dados. No aperto de 0,80 m, a entrada veio curvada: o
`collision_monitor` entrou em `STOP:PolygonStop` às 2030,506 e só liberou
5,282 s depois. O seguidor continuava pedindo 0,50 m/s; o reflexo zerou
`/auto_vel`. O `path_follower` detectou o emperramento, fez escape reto de
0,21 m e o robô corrigiu e passou. Portanto foi uma parada de proteção e uma
recuperação lenta, não falta de rota do planner. A primeira porta também teve
um escape de 0,21 m, sem `STOP` do monitor.

Evidência e análise: `docs/dados/2026-09-28-robo3-gazebo-manual/`. O bag MCAP
bruto (23,1 MiB, hash registrado) fica em
`~/sessao-manual-robo3/20260928_160300/`, fora do Git por convenção.

O bag fechou, mas informou uma mensagem perdida no transporte. O `tee` do
launch terminou no `Ctrl-C` e não gravou o teardown; zero processo, marca e
SHM foram conferidos depois, mas a sessão não conta como prova positiva nem
negativa do SIGSEGV da 057. Nenhum patch de produção foi feito. O bloqueio de
hardware continua.

## 🟢 2026-09-29 (PC de dev, GAZEBO + RVIZ, robô e lidar DESLIGADOS) — IDA E VOLTA LIMPAS, E O REBOTE DE 9,6 CM ERA O FREIO DO ROBÔ 2

Primeira sessão desta máquina na `etapa6-pilha-robo3` (a `main` não tem a
etapa 6). O `install/` estava na `main` antiga e o `colcon build` reprovou em
`wheel_msgs` — `build/` sujo de uma compilação anterior sem `--symlink-install`.
Apagar `build/`, `install/` e `log/` e recompilar do zero resolveu: 7 pacotes
em 22,1 s.

Pré-voo antes de subir: zero processo ROS/Gazebo, porta 5000 livre, e **três
segmentos de SHM órfãos de 22-09** — todos com a trava `_el`, removidos pelo
`fastdds shm clean`. Pilha no domínio 50, `robo:=3 sim:=true gui:=true
rviz:=true localizacao:=fixa`. TF `map→base_link` em (2,000; 5,000), `/scan` a
~6 Hz, `/navigate_to_pose` presente.

⚠️ A primeira consulta de `ros2 action list` respondeu **AUSENTE** e a segunda,
segundos depois, listou a ação. Foi cedo demais, não defeito — mas serve de
lembrete de que uma leitura só não é pré-voo.

### As corridas

O dono mandou um objetivo pelo RViz, o robô atravessou a pista, e depois
mandou **voltar ao ponto de partida** — a volta também fechou. Avaliação dele:
*"se ele se mover assim na vida real é o melhor q tivemos até hoje"* e *"se o
real se mover assim vencemos tudo"*. Visualmente bom; ele registrou que ainda
dá para ficar mais "clean" andando.

### O defeito que ele apontou: o pulinho de rebote

*"ele quando para, da um pulinho de rebote pra trás, isso surgiu como freio do
robô 2 e ele pegou."* Estava certo, e os dados fecham a cadeia inteira: a
entrada do compensador vai a zero, 2 ms depois a **saída** vai a −0,500 m/s, o
robô cruza o zero 0,64 s depois da chegada, chega a −0,245 m/s e estaciona
**9,6 cm atrás**. É o `FreioLinear` da 038, ligado (conferido por
`ros2 param get` no nó vivo).

Isso foi levado a uma revisão independente, que confirmou o diagnóstico e
acrescentou quatro ressalvas — todas incorporadas na decisão **062**: o
simulador do robô 3 usa a placa `medido` **do robô 2**; desligar o freio afeta
também o `STOP:PolygonStop`, não só a chegada; quatro apoios não anulam torque
retido pela eletrônica; e a mensagem de `ERROR` do compensador era específica
do robô 2.

### O teardown e o custo do bag

A revisão avisou que o bag passava de 6,6 GB **ainda crescendo** — `--all-topics`
grava a nuvem do Livox simulado. O dono mandou matar. SIGINT nos três grupos de
processo (o `setsid` cria grupo próprio: o PGID que eu tinha anotado era o do
meu shell, não o da pilha).

✅ Teardown **limpo**: zero processo, bag fechado em 9,5 GB, e **nenhum
SIGSEGV** — todos os nós saíram com `exit -2`, que é SIGINT. A dívida 057 não
apareceu. ⚠️ Eu cheguei a anunciar 15 SIGSEGV: era um `grep` meu contando
`process has died` junto, erro de leitura, corrigido na hora.

Sobraram **68 segmentos de SHM**. Um `ros2-daemon` do domínio 50 — das minhas
próprias consultas, não da pilha — segurava parte deles; `ros2 daemon stop`
soltou. O `fastdds shm clean` levou os que tinham `_el` e **52 ficaram sem a
trava**, o caso exato da 061 §2.3.2. Foram pela remoção controlada do
`shm_recupera.py`, com "nada vivo" reconferido por `/proc`. Recontagem final:
**zero**.

⚠️ **Fracasso do método, registrado:** o inventário "antes" eu **reconstruí**
depois do fato (o `/dev/shm` estava zerado às 10:38, eu mesmo limpei antes de
subir). A ferramenta recusou na primeira tentativa — com o "antes" vazio, os
arquivos de sistema (`lttng`, `snap.*`) viraram candidatos e ela interrompeu
sem remover nada, que é o comportamento certo. Se esta fosse corrida oficial, o
inventário teria de ser tirado ANTES de subir.

### A mudança (decisão 062)

`freio_linear` virou argumento da pilha com default **por robô**: `true` no 2
(nas duas bordas), `false` no 3. A lei não mudou, o nó não mudou, o robô 2 não
mudou — mudou quem liga. A mensagem de bringup com o freio desligado deixou de
ser `ERROR` com o número do robô 2 e virou `warn` que diz o que de fato não
está medido.

Cinco testes novos, com as **duas mutações conferidas** (default sempre `true`
derruba o teste do robô 3; sempre `false` derruba os dois do robô 2). Suíte
completa: **1768 passaram, 0 falharam**.

🔴 **O que NÃO prova:** nenhuma corrida foi rodada depois da mudança — o A/B da
062 §7 está em aberto, e ele precisa repetir **a passagem da segunda porta**,
não só uma parada em área livre. Nada de hardware.

### Combinado para a sequência

1. destrinchar como o robô se moveu nesta ida e volta (bag de 9,5 GB);
2. **acoplar o web ao robô 3**, para aposentar o RViz como forma de mandar
   objetivo;
3. gravar uma corrida ida-e-volta dentro da salinha daquele mapa;
4. começar os preparativos do teste no robô real — o passo crucial, sabendo
   que o robô real se move diferente da simulação.
