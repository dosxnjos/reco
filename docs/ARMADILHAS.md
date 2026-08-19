# Armadilhas do Reco

Coisas que **parecem** funcionar e não funcionam, com o sintoma que elas produzem
e a causa real. Ler antes de "consertar" qualquer uma delas — várias já custaram
tempo e estão aqui justamente para não custarem de novo.

Padrão herdado do `nomura-bi`. Cada entrada: **sintoma → causa → o que fazer**.

---

## `no_repeat_ngram_size` não faz nada no `WhisperPipeline` (29/07/2026)

**Sintoma:** uma palavra ou frase se repete dezenas de vezes na transcrição
(caso real: `"o que é"` **147 vezes seguidas** num arquivo de 18/07/2026, e
`"que é"` **221 vezes** numa janela de outro). O código *parece* protegido:
havia um `cfg.no_repeat_ngram_size = 4` exatamente para isso.

**Causa:** o atributo **existe** em `WhisperGenerationConfig` — então atribuir
não levanta exceção, e um `try/except` em volta não denuncia nada — mas o
`WhisperPipeline` do `openvino_genai` **o ignora**. Medido: gerando com o
parâmetro desligado e com ele em 4, os textos saem **byte-idênticos**
(2590/2590 e 1427/1427 caracteres).

Pior: o `openvino_genai` 2026.2.1 **não expõe** `compression_factor_threshold`,
`logprob_threshold` nem `condition_on_prev_tokens` — é esse trio que o Whisper de
referência usa para perceber que uma janela degenerou e refazê-la com temperatura
maior. Ou seja, **não existe defesa nenhuma vinda da biblioteca**.

**O que fazer:** a defesa é nossa e vive em `OVTranscriber._degenerado()` +
`_generate_sem_loop()` (`reco.py`). Detecta pela taxa de compressão zlib (> 2,4,
o mesmo limiar do Whisper de referência) e por repetição consecutiva de qualquer
n-grama de 1 a 8 palavras (> 3×), e refaz a janela com temperatura 0,2 → 0,4 →
0,6. Se as três degenerarem, **descarta a janela** — texto ausente é melhor que
147 repetições. Validado: 221× → 2×.
Não reintroduzir `no_repeat_ngram_size` achando que resolve.

---

## Mudar `_CFG_DEFAULTS` é inócuo para quem já abriu o app (29/07/2026)

**Sintoma:** troca-se o default (por exemplo `"model"` de `small` para
`large-v3-turbo`), testa-se numa máquina limpa, funciona — e no computador do
usuário nada muda.

**Causa:** `load_config()` parte dos defaults e depois **deixa o arquivo salvo
sobrescrever** (`cfg.update(json…)`). Isso é o comportamento correto (a escolha
do usuário tem de ganhar), mas significa que qualquer default alterado só alcança
quem **nunca** salvou config. O `~/.reco_config.json` do Gabriel tinha
`"model": "small"` gravado, então a troca de modelo não teria chegado nele.

**O que fazer:** toda mudança de default que **precisa** alcançar usuários
existentes exige uma migração: subir `CFG_MIGRACAO` e tratar o caso em
`_migra_config()`. A migração roda uma vez (marcada em `_migracao` no próprio
JSON) e só promove valores que eram o **default antigo** — uma escolha deliberada
do usuário (ex.: `medium`) é preservada.

---

## A NPU leva ~7 minutos para compilar o modelo na primeira vez (29/07/2026)

**Sintoma:** ao transcrever pela primeira vez com um modelo novo na NPU, o app
fica parado por vários minutos sem sinal de vida. Parece travamento.

**Causa:** é compilação real do grafo para o acelerador. Medido: **415 s** para
`large-v3-turbo` na NPU (contra ~10 s na iGPU). Fica em `CACHE_DIR`
(`_user_data_dir()/ovcache`), então acontece **uma vez por (modelo, device)** —
mas uma vez por combinação, não uma vez na vida.

**O que fazer:** `_pipeline()` marca cada combinação já compilada com um arquivo
`.compilado-<size>-<device>` no cache e mostra um aviso explícito na primeira vez.
Não remover esse aviso; sem ele o usuário mata o app achando que pendurou.

---

## `cancel_echo`: 37 dB no sintético, 3 dB no áudio real (29/07/2026)

**Sintoma:** o cancelamento de eco estava documentado como "~37 dB ERLE
validado", mas o eco da caixa de som continuava audível e a diarização seguia
atribuindo ao usuário falas do interlocutor.

**Causa:** os 37 dB eram reais — em eco **sintético**, linear e invariante no
tempo. A implementação estimava **um** ganho complexo por bin de frequência para
a janela **inteira** de 30 s, o que assume que o caminho acústico é invariante
por 30 s e cabe num único quadro de FFT (64 ms). Numa sala real, medido nas
gravações do próprio Gabriel: **+3,2 dB** e **+3,7 dB**, com acoplamento
caixa→mic de −17,9 dB e −23,7 dB (abaixo de −35 dB seria desprezível).

**O que fazer:** a versão atual usa mínimos quadrados em blocos de 2 s com 6 taps
(~96 ms) + pós-supressão residual, e entrega **+7,2 dB** custando 0,3 dB da voz
do usuário. **Não tentar chegar a 20-40 dB alongando o filtro** — ver a armadilha
seguinte. E sempre medir ERLE em áudio **real**, nunca em eco sintético: é
exatamente esse teste que validou uma implementação que não funcionava.

---

## O teto do AEC é deriva de clock, não o filtro (29/07/2026)

**Sintoma:** melhorar o filtro de eco dá ganhos que estancam por volta de 7 dB,
e a melhora some em gravações longas.

**Causa:** microfone e loopback do sistema correm em **relógios de hardware
independentes**. Medido pelo atraso ótimo de correlação ao longo do arquivo:

| gravação | atraso mic↔loopback | desvio-padrão | deriva |
| --- | --- | --- | --- |
| 5,7 min | 608 amostras (38 ms) | **0** | 0,1 ppm |
| 80 min | 2283 amostras (143 ms) | **2314** | **−65,8 ppm** (≈ −237 ms/h) |

Em gravação curta o alinhamento é estável; em 80 minutos ele passeia centenas de
milissegundos. Nenhum filtro linear acompanha isso sem **reamostragem contínua**
de compensação.

**O que fazer:** aceitar o teto. Passar dele exigiria compensar a deriva *e* a
distorção não-linear da caixa — caro e incerto. Para o objetivo real (diarização
correta), o caminho barato é decidir o locutor por **dominância de energia entre
os canais**, que é robusto a eco residual e não depende de cancelar nada. Fone de
ouvido continua sendo a solução de custo zero que elimina o problema na origem.

---

## `np.linalg.solve` mudou de semântica no numpy 2.x (29/07/2026)

**Sintoma:** `ValueError: solve: Input operand 1 has a mismatch in its core
dimension 0, with gufunc signature (m,m),(m,n)->(m,n)`.

**Causa:** com `A` de forma `(lote, P, P)` e `b` de forma `(lote, P)`, o numpy 1.x
tratava `b` como pilha de vetores; o 2.x trata como matriz e o lote não bate.

**O que fazer:** passar `b[:, :, None]` e tirar a dimensão depois:
`np.linalg.solve(A, b[:, :, None])[:, :, 0]`.

---

## NLMS ingênuo diverge quando a referência silencia (29/07/2026)

**Sintoma:** um AEC adaptativo protótipo devolveu **ERLE de −38 dB** — ou seja,
amplificou o sinal em vez de limpá-lo.

**Causa:** o passo do NLMS é normalizado pela energia da referência
(`e / potência`). Quando o canal do sistema fica em silêncio, a potência tende a
zero, o passo explode e o filtro diverge.

**O que fazer:** usar mínimos quadrados com regularização de Tikhonov relativa à
energia **do próprio bloco** (solução fechada, estável por construção), como está
em `cancel_echo`. E manter a rede de segurança que devolve o áudio original se a
saída sair mais alta que a entrada — um AEC nunca deveria aumentar o sinal.

---

## Medir "impacto em outros apps" com numpy é medir a coisa errada (29/07/2026)

**Sintoma:** um benchmark de convivência acusou combinações rodando **mais
rápido** que a máquina ociosa e o app vizinho **acelerando** durante a
transcrição. Resultado incoerente, descartado.

**Duas causas somadas:**

1. O "vizinho" usava `numpy @ numpy`, que aciona **BLAS multi-thread** e satura
   todos os núcleos. Isso simula um segundo job pesado, não um app interativo — e
   ainda distorce a medida de velocidade do que se está medindo (a iGPU caiu de
   14,9× para 7,2× por causa dele).
2. O baseline "ocioso" é medido com a CPU em **frequência baixa**. Quando a
   transcrição carrega a máquina, o governor sobe o clock e o vizinho fica
   genuinamente mais rápido. O baseline é que estava lento.

**O que fazer:** medir **latência**, não throughput, com um vizinho
single-thread em **processo separado** que acorda periodicamente e faz trabalho
fixo (`temp/vizinho.py`) — é o perfil de um app de interface. E lembrar que esse
teste é puro CPU: ele **não** mede a iGPU disputando com renderização de tela e
vídeo, que é o cenário "transcrever durante reunião com câmera".

## `--diarizar` sem `--aec` não separa nada em gravação no alto-falante (03/08/2026)

**Sintoma:** rodamos `transcrever.py --diarizar` numa gravação real para
responder "quem falou esta frase — o Gabriel ou a interlocutora?". A saída veio
com **as duas faixas repetindo o mesmo texto**, deslocadas por uma fração de
segundo: cada frase aparece uma vez em `Interlocutor(es)` e de novo em `Eu`.
Inútil para atribuir autoria.

**Causa:** a gravação foi feita **sem fone**. O áudio do sistema saiu pelos
alto-falantes e voltou pelo microfone, então o canal do mic contém a fala do
outro lado — e `--diarizar` **sozinho não cancela eco**, só separa canais.

**A correção é usar as duas flags: `--diarizar --aec`.** Refeito assim, no mesmo
arquivo, a separação ficou limpa: blocos longos da interlocutora de um lado,
intervenções curtas do Gabriel do outro, e o `.txt` encolheu **38%** (69 KB →
42,6 KB) — o que sumiu era a duplicata de eco.

⚠️ **Meça antes de confiar.** `tools/medir_eco.py <mp3>` dá acoplamento e ERLE
reais **daquela gravação**. Neste arquivo: acoplamento caixa→mic **−20,5 dB** e
ERLE mediano **+17,6 dB** (min 1,4 / max 23,8) — resíduo em torno de −38 dB,
desprezível. O "~7 dB" citado no `CLAUDE.md` é o número de **uma** medição de
29/07, não uma constante: o ERLE varia com volume, sala e microfone. Abaixo de
~10 dB, a diarização volta a errar mesmo com `--aec`, e aí não há flag que
salve — só gravar de fone.

**Efeito colateral a conhecer:** onde o AEC zera o canal do mic (a interlocutora
falando sozinha), sobra silêncio — e o Whisper **alucina** nele, tipicamente
`"Obrigada."` repetido. Não é fala real perdida (é o oposto: o Gabriel
realmente não falava ali), mas polui a faixa `Eu:`. Ao ler, descartar linhas
`Eu:` curtas e genéricas que não respondem ao contexto.

## `sounddevice`/PortAudio não serve para captura neste hardware (06/2026)

**Sintoma.** Antes do Reco existir, o motor de captura (então em
`C:\Dev\mp4wav\gravador.py`) usava `sounddevice`. Três defeitos, todos medidos
na máquina do Gabriel (Realtek + Intel Smart Sound, Win 11, Python 3.14,
sounddevice 0.5.5):

- **O mesmo microfone aparecia 2–4× na lista.** PortAudio expõe cada dispositivo
  físico uma vez por host API (MME, DirectSound, WASAPI, WDM-KS), com nomes
  ligeiramente diferentes — MME trunca em 31 caracteres, WDM-KS acrescenta
  `" 1 ()"`. Deduplicar por nome exato não resolve, porque os nomes divergem.
- **Alto-falante entrava na lista de microfones.** Endpoints de *render* do
  WDM-KS reportam `max_input_channels=2` — falso.
- **Nenhum dispositivo WDM-KS abre** (`PaErrorCode -9999`), incluindo a
  "Mixagem estéreo" que o código antigo escolhia para o áudio do sistema. A
  exceção era engolida no `_rec_sys` e a faixa do sistema saía **vazia, em
  silêncio, sem erro**.

**Causa raiz.** `sounddevice` 0.5.5 **não expõe loopback WASAPI**:
`WasapiSettings` não tem o kwarg `loopback`, e abrir um dispositivo de render
como `InputStream` dá "Invalid number of channels". Sem loopback, só sobrava o
Stereo Mix — que é justamente o que não abre.

**Por isso `soundcard`.** Usa WASAPI exclusivamente: uma entrada por endpoint
(sem duplicata, sem alto-falante virando microfone) e
`sc.get_microphone(speaker.id, include_loopback=True)` dá loopback de verdade,
sem depender de Stereo Mix. Persistir dispositivo pelo `.id` (estável, tipo
GUID) e exibir o `.name`. Capturar as duas fontes a 48000 Hz fixo (nativo aqui)
e reamostrar ao salvar. Os gravadores funcionam em thread daemon sem init
manual de COM.

⚠️ Isso vale ao considerar trocar a lib de captura: `sounddevice` é a escolha
óbvia e mais popular, e **já foi testada e reprovada** neste hardware. Não é
questão de gosto.

## `tools/test_live.py` falha por GPU indisponível, não por regressão (12/08/2026)

**Sintoma.** Rodar `tools/test_live.py <mp3> 60` nesta máquina imprime
`FALHOU: critério = latência mediana <= 5s` (saiu 9,8s de mediana), acompanhado
de dezenas de linhas `onednn_verbose... errcode -59, CL_INVALID_OPERATION` e
`no opencl gpu device is available`.

**Causa.** O device resolvido pelo pipeline (`AUTO` → `GPU`) não conseguiu abrir
o backend OpenCL no momento do teste — cai pra CPU em silêncio, que é bem mais
lento pro modo ao vivo. **Não é regressão de código**: confirmado em
`roadmap/2026-08-12-melhoria-ux-ui-logica.md` Fase 1 (execução de 12/08)
rodando o mesmo teste antes e depois do patch (`git stash`) — falha idêntica
nos dois lados.

**O que fazer.** Não tratar uma falha desse teste como sinal de bug introduzido
sem antes descartar causa ambiental: rodar `git stash` (ou comparar contra o
commit anterior) e repetir o teste. Se a falha persistir idêntica dos dois
lados, é o ambiente (GPU ocupada/indisponível naquele momento), não o código.
O roadmap de 12/08 (Fase 1.4) cita esse script como prova de não-regressão do
`LiveTranscriber.stop(discard=True)` — ele serve pra isso (o app não trava, a
passada final roda), mas **não** serve como gate de latência enquanto esse
problema de GPU não for investigado à parte.

## `medir_eco.py` subestima o eco por construção (19/08/2026)

**Sintoma.** A métrica do projeto reporta acoplamento caixa→mic de −20 a −31 dB
("quase desprezível") em gravações cujo canal de mic é, na verdade, **dominado**
pelo áudio do PC — e o eco continua audível no MP3.

**Causa.** O rótulo de "só o PC falando" exige que o mic esteja quase mudo:

```python
so_sys = (s >= lim_s) & (m < lim_m * 3)
```

Como o eco entra no mic, todo bloco com eco **forte** é reclassificado como
`ambos` e sai da conta. No arquivo de 19/08 11:00: 1753 blocos `so_sistema`
contra **11448 `ambos`** (59% do arquivo). A medida acontece nos ~9% de blocos
onde o eco é mais fraco — é viés de seleção, não medição.

**O que fazer.** Medir por **predição**, não por rótulo de energia: estimar o
caminho de eco por mínimos quadrados (a voz do near-end é descorrelacionada da
referência, então o LS é não-viesado mesmo com fala em cima) e reportar a fração
da energia do mic que a referência explica. Medido assim, no mesmo arquivo:
**77% a 93%** (contra −30,9 dB da métrica antiga). E **sempre rodar o controle
negativo** — a mesma estimativa com referência falsa (outro trecho, canal
invertido, ruído branco) explica 1–5%; sem esse controle não há como distinguir
medição de sobre-ajuste. Números históricos (−17,9 / −23,7 / −20,5 / −30,9 dB)
herdam o viés: não citar como acoplamento real.

⚠️ Este é o viés do **acoplamento**. O mesmo script tem um segundo problema, pior
e independente: os rótulos são por energia **simultânea**, o que com canais
desalinhados troca eco por voz — ver a armadilha seguinte.

---

## Rotulagem por energia simultânea mede o OPOSTO quando os canais estão desalinhados (19/08/2026)

**Sintoma.** Medindo o `cancel_echo`, o AEC aparecia **destruindo a voz do
usuário em até 28,4 dB** nos blocos rotulados "só o usuário fala". O diagnóstico
que saiu disso — "o AEC não tem detector de double-talk e está apagando a voz" —
foi escrito, commitado (`76bcb9c`) e está **errado**.

**Causa.** O rótulo vinha de energias **simultâneas** (`mic` alto e `sistema`
abaixo do limiar, no mesmo bloco de 100 ms), e o eco chega ao mic **~200 ms
depois** (latência de buffer entre os streams). O bloco em que o sistema já
silenciou mas o mic ainda toca o rabo do eco é rotulado "só o usuário falando" —
o AEC remove eco de verdade ali, e a métrica registra como voz destruída. O
espelho do mesmo erro infla `so_sys`: o mic aparece em −51 dBFS porque o eco
daquele trecho ainda não chegou, e o "ERLE" ali é atenuação de ruído de piso.

**Como foi pego** (vale mais que a conclusão): a "correção" não fechava. O
detector de double-talk derrubou o dano de 28,4 → 9,1 dB mas matou o ERLE
(+15 → +0,5), o que nenhum DTD deveria fazer. Depurando a janela suspeita, os
blocos que "perdiam 34 dB de voz" perdiam 23,7 dB **mesmo com `residual=False`**
— subtração linear pura só remove tanto se o conteúdo estiver na referência. Era
eco. Rotulando com o sistema **alinhado**, o mesmo código mediu **+15,6 dB de
ERLE com +0,5 dB de dano**.

**O que fazer.**

- Rotular far-end-only / near-end-only **sempre** com o canal do sistema alinhado
  (`_alinhar_canais`) — é o que `tools/medir_aec.py` faz. `tools/medir_eco.py`
  **não** faz, e por isso não serve para julgar AEC.
- Reportar AEC como par **(ERLE, dano na voz)**. ERLE sozinho não distingue
  cancelar de abaixar o volume — isso continua verdade, e é por isso que o par
  existe; o que era falso é o número que ele acusou.
- Números honestos do `cancel_echo` (19/08, rotulagem alinhada): ERLE mediano
  **+15,5 / +6,4 / +9,0 dB** em três gravações, dano **≤ +1,2 dB**; a
  decomposição dá +8,7 dB de cancelamento linear e +6,8 dB de pós-supressão.
- E a lição de método: **quando a correção de um defeito "resolve" o número mas
  destrói o resultado que deveria preservar, suspeite da medição antes de aceitar
  o trade-off.**

---

## Os canais do MP3 saem desalinhados por ~200 ms (19/08/2026)

**Sintoma.** Ao ouvir a gravação, a fala do interlocutor aparece duas vezes com
separação nítida — soa como eco de sala grande, não como vazamento fraco.

**Causa.** Não é acústica: eco de caixa a um metro são ~3 ms. Medido no arquivo
de 19/08 11:00, o atraso mic↔loopback é de **3241 amostras (203 ms)**, com jitter
de 24 ms entre janelas e deriva de +21 ppm (+76 ms/hora). É **latência de buffer**
entre os dois streams: o `DualRecorder` sincroniza o *início* dos streams com
`threading.Barrier`, mas o loopback entrega o primeiro bloco com offset próprio, e
`_pump` pareia por **contagem de amostras** — o offset inicial fica gravado para
sempre. Acima de ~50 ms o ouvido deixa de integrar a reflexão como reverberação e
passa a ouvir eco separado, então esse offset é provavelmente a causa da queixa,
mesmo quando o acoplamento é modesto.

⚠️ **O sinal do offset varia entre gravações.** No arquivo de 18/08 15:16 o
loopback vem DEPOIS do mic, e o atraso chega a **−6385 amostras (−399 ms)** —
fora da busca de ±0,2 s que `_alinhar_canais` usava. Consequência medida: o AEC
saía com **ERLE negativo** (−1 a −6 dB, ou seja *somando* energia) naquele
arquivo. Corrigido em 19/08 subindo `maxlag_s` para 0.5 s; com a busca larga o
mesmo arquivo dá +4 a +10 dB. Implementação de alinhamento que assuma sinal
positivo está errada.

**O que fazer.** Compensar o offset na gravação (Fase 1 do roadmap de 19/08) —
alinhar não é "processar o áudio", é corrigir buffer, e é pré-requisito de
qualquer AEC e da diarização. ⚠️ E não confundir alinhar com cancelar: alinhar +
ganho escalar ótimo dá **−1,1 dB** de ERLE (não cancela nada); o ganho do
alinhamento é percepção e correção do resto do pipeline.

## `print` com emoji derruba script no console desta máquina (19/08/2026)

**Sintoma.** `UnicodeEncodeError: 'charmap' codec can't encode characters` no meio
de um teste de hardware que já tinha começado a gravar — perdendo a execução
inteira por causa de uma linha de aviso.

**Causa.** O console do Windows aqui é **cp1252**; `⚠️` (e qualquer caractere fora
dessa página) não tem representação, e o `print` levanta exceção em vez de degradar.

**O que fazer.** Nos **scripts de `tools/`**, prints em ASCII puro (`***`, `!`,
`->`). Emoji só em arquivo de texto (md, docstring que ninguém imprime) e na UI do
Tkinter, que é Unicode de verdade. Vale principalmente para script longo: falhar no
minuto 2 de um teste de 3 minutos por causa de um aviso é o pior custo possível.
