# 声音命令的参数手册

`playbook/04-audio.md` 讲声音怎么做、怎么判断；这里是 `bin/vh` 各条声音命令的细节：参数、文件格式、实测数字和已知局限。用到哪一节查哪一节，不用通读。各步的实现另写在对应脚本的开头（`tts.py`、`captions.py`、`music.py`、`instruments.py`、`motifs.py`、`sfx.py`、`mix.py`、`qa.py`）。

## 配音（`tts`、`captions`）

### 句首句尾的静音

- 每句合成后，provider 自带的句首句尾静音（低于 −50 dBFS）会被裁掉，只留人声前 30 ms、后 80 ms，所以句间距离就是 `--gap`，按拍落点时人声也落在拍上。qwen 的英文音色 Ryan 每句开头有约 0.45 s 空白，edge 每句结尾有约 0.85 s，不裁的话节奏全被拖慢。阈值用 −50 而不用 −45：−45 会切掉 f、h 这类弱起音（最长 70 ms）。一个响的 10 ms 窗口只有在相邻窗口也响时才算人声，所以落在单个窗口之内的 click、pop 不会让裁剪停在它那里（跨两个窗口的短促爆发仍然算），句首句尾都这样处理。第一个词之前的呼吸声、含糊声高于 −50 dBFS，不算静音，裁不掉，要靠 `--align gemini` 的句首检查标出来。`--join` 时只裁整段的首尾，段内的停顿是表演的一部分。想保留原样，加 `--keep-edges`；

### provider 一览

| provider | 类型 | 需要什么 | 时间精度 | 状态 |
|---|---|---|---|---|
| `qwen`（默认） | **本地开源** Qwen3-TTS（Apache-2.0），mlx-audio 运行在 Apple Silicon 上。中文音色：Serena（温暖女声）、Vivian、Uncle_Fu、Dylan（京腔）、Eric（川话）；英文音色：Aiden（默认）、Ryan（语速慢，0.6B 模型用它时经常拖出几秒到几十秒的含糊声） | 首次运行下载约 2GB；换 1.7B 模型（`QWEN_TTS_MODEL`）后可以用 `--instruct` 控制语气 | 句级 | ✅ 已实测中英 |
| `say` | macOS 自带，离线，适合打草稿 | 无 | 句级 | ✅ 已实测 |
| `edge` | 微软免费在线音色 | 联网；非官方接口 | 句级 | ✅ 已实测英文 |
| `dashscope` | 阿里云百炼 Qwen3-TTS（`qwen3-tts-flash`），云端 | `DASHSCOPE_API_KEY` | 句级 | 接口已留，待实测 |
| `elevenlabs` | 高质量多语种配音 | `ELEVENLABS_API_KEY`、voice_id | **词级**（接口给字符级，`bin/vh tts` 拼成词） | 接口已留，待实测 |
| `gemini` / `gemini-lite` | Google Gemini 3.8 Flash TTS（2026-09-23 发布）/ Flash-Lite TTS，云端。表演力强，适合讲解旁白和双人对话。Flash 支持 130 种语言，Lite 支持 101 种，都含中文，语言按文本自动识别。`--voice` 用 30 个 studio 音色之一（默认 Kore，每个都能说所有支持的语言）、音色库 id 或自己设计的 `voice_…`（见下文"音色"）；`bin/vh tts` 的第 5 个参数（`--instruct`）用一句话描述语气，例如"平静、笃定的纪录片旁白"；稿子里可以直接写 `<short pause>`、`<breath>`、`<laugh>` 这类标签，只有 gemini 会演出来，其他 provider 和字幕都会自动去掉 | `GEMINI_API_KEY`（Google AI Studio）。有免费档，但免费档的内容可能被 Google 用来改进产品；付费价格见下文"费用" | 句级；加 `--align gemini` 后为词级 | ✅ `gemini`：2026-09-30 实测中英（Kore / Charon），一次通过，逗号处有自然停顿；双人对话、整段合成、设计音色同日实测。`gemini-lite` 走同一条代码路径（只换模型 id），没有单独实测 |
| `minimax` | MiniMax T2A v2（`speech-2.8-hd`），国际站 `api.minimax.io`，云端。中文系统音色是 `Chinese (Mandarin)_*`（默认 `Chinese (Mandarin)_Reliable_Executive`），英文默认 `English_expressive_narrator`。句子里可以写停顿标记 `<#0.4#>`，稿子里可以写发音词典 `@pronounce`；`--join all` 整份稿一个请求，音色不漂。见下文"MiniMax" | `MINIMAX_TOKEN_PLAN_KEY`（Token Plan，优先）或 `MINIMAX_API_KEY`（按量付费） | **词级**（请求自带逐字时间，不用转写） | ✅ 2026-10-07 实测中英：逐句、`--join block`、`--join all`、`--resume` |

**已知问题**：默认的本地 Qwen3-TTS 0.6B 模型念英文短句时偶尔停不下来。实测 "One sentence in, a film out." 念完后又多出约 10 秒低电平的含糊声音，整句 12.6 s。所以每条配音都要查一遍：加 `--align gemini` 让机器查（见下一节），或者至少看一眼 `timeline.<lang>.json` 里的时长。被标出来的那句重跑，或者换 1.7B 模型、换 `gemini`。同一稿 Gemini 的四条都正常。

### 词级时间和对稿检查（`--align gemini`）


`--align gemini` 对任何 provider 都能用：每句合成完，交给 Gemini 3.5 Transcribe（`gemini-3.5-transcribe`）转写一遍，拿回带时间戳的词，再和稿子逐字对齐。结果写进 timeline：
- `words`：`[{w, start, end}]`，字段和 elevenlabs 的一样，但文字用**稿子里的写法**（ASR 听成同音字也不影响字幕），时间用 ASR 的。中文基本是一字一个 word；
- `asr`：`{text, similarity, head, tail, flag?}`。`similarity` 是 ASR 文本和稿子的相似度（0–1，按汉字和英文单词比，忽略标点、大小写和他/她/它这类同音字）。低于 `--min-sim`（默认 0.85），或者第一个词之前、最后一个词之后多出 1 s 以上的声音，就标上 `flag`，命令最后逐句列出来。

被标出来的句子会自动复查一次：用 `custom_vocabulary` 把识别往稿子上偏。词表只放稿子里对不上的那几处短语、稿中的英文术语和 `--vocab` 给的词，不拿整句当词表，免得把真念错的地方也"纠正"掉。API 不允许 `custom_vocabulary` 和词级时间戳同时用（实测返回 400），所以复查只拿文字。

实测（2026-09-30）：
- 一句中文、一句英文（Gemini 合成，约 4 s）：相似度都是 1.00，每次转写 3.3–3.7 s；
- 模拟 Qwen 停不下来：同一句后面接 8 s 低音量的无关絮语，相似度掉到 0.47，并报"最后一个词之后还有 5.5 s"；接 8 s 近乎无声的底噪，文字全对（1.00），但报"最后一个词之后还有 8.2 s"。两种都抓到了；
- 双人对话里，ASR 会把 B 说话时 A 的一声"嗯"也转出来。这种插话按稿子里的 `|嗯|` 算，不扣分。

局限：时间戳的步长是 0.1 s（30 fps 下 3 帧）；数字可能被规范化（"二十六"转成"26"），相似度会降，但不算念错；每次调用有 3–7 s 延迟，逐句模式下 4 句并发。费用约 $0.005 / 分钟音频（付费档），免费档不收费。Tier 1 每分钟只能转写 10 次，超过 10 句（算上复查）时会碰到 429：这时按接口给的时间等（通常不到 1 分钟）再重试，12 句实测 155 s 跑完。429 写明是日配额用完的（见下文"转写的配额"），或者要求等 90 s 以上的，直接报错，不再等。转写失败到底（日配额、断网、某个文件坏了）也不丢配音：`voiceover.<lang>.wav` 和 timeline 在合成后就先写好，出错的句子保留实测时长、`asr` 里记 `error`，命令以非 0 退出；修好原因后用**同一条命令**加 `--resume` 接着跑：只补合成缺的文件（合成中途失败也一样），转写成功过的句子不再重转（结果存在 `vo/<lang>/*.asr.json`），其余重做；`--join` 时整段音频留在 `vo/<lang>/_blockNN.wav`，在那之前它的几句共用整段的起止（`minimax` 例外：句子照样按它自己的逐字时间切开）。那次运行的稿子、provider、音色、语气指示（`--instruct`）和 `--join` 方式记录在 `vo/<lang>/_run.json` 里，`--resume` 要求它们一样，改了就拒绝并指出改了什么（对拍、间距这些时间参数可以改）。不带 `--align` 的普通合成中途失败，也用同一条命令加 `--resume` 接着合成；合成好的普通配音之后再加 `--align gemini --resume`，只做转写，不再合成。key 在合成前就检查。


需要更细的强制对齐（音素级、离线）时，仍然可以用 mlx-audio 的 Qwen3-ForcedAligner、FunASR 或 whisper.cpp，这些没有封装。

### 字幕：词级时间和最短时长

**字幕用上词级时间**：timeline 里有 `words` 时，`bin/vh captions` 会在 `captions.json` 的每条里加上 `words`（绝对时间，引擎可以做逐字高亮、逐词弹出），并多写一个 `captions.<lang>.lines.srt`：一条字幕折成几行，就拆成几个 cue，每行在它的第一个字念出来时才出现。原来的 `captions.zh.srt` 等文件不变。

**字幕的最短时长**：念得快的短句，字幕自己可能只有 1–1.7 s，低于 `readcheck` 的字幕下限（1.8 s）。`bin/vh captions` 会把这样的字幕条的**结束时间**往后延进它后面的空隙：最多延到 1.8 s，或者下一条的开头减 0.1 s，或者画面的结尾，取最早的一个（画面比最后一句话长，所以结尾不取配音的时长：依次取 `--media-end S`、项目 `index.html` 根节点的 `data-duration`、`media/final.mp4` 的时长、最后才是 timeline 的 `duration`）；开头不动，也不会和下一条重叠。每个字幕文件（`.lines.srt` 也是，它的最后一行跟着整条字幕一起结束）和 `captions.json` 里都是延长后的结束时间，`captions.json` 在被延长的条目上用 `speech_end` 留着念完的时间。空隙不够、延不到 1.8 s 的，命令会逐条列出来，由你决定把下一句往后挪，还是接受。

### 双人对话（gemini）


稿子开头写一行 `@speakers`，把说话人标签对到音色上；之后每句在 `@id` 和 `[指示]` 后面写 `标签:`（中英文冒号都行）：

```text
@speakers A=Kore B=Puck
@q1 A: [好奇] 你猜这支片子手写了几行代码？ || Guess how many lines of this film were written by hand?
@a1 B: [压低声音，卖个关子] 一行都没有。 |嗯？| 全是它自己写的。 || Not a single one. |huh?| It wrote all of them.
@q2 A: 真的假的！ || No way!
```

- 只有 `@speakers` 里声明过的标签才算说话人，普通旁白里的"注意："不受影响。英文一侧重复写的标签（`A: …`）会一并去掉；
- `|嗯？|` 是**对方**的插话（backchannel），写在当前说话人的句子里，竖线内侧不要留空格。它只在 gemini 对话里出声，字幕和其他 provider 都会去掉。只有写了 `@speakers` 的稿子才有插话，普通旁白里的 `|x|`（比如绝对值）原样保留；
- gemini 默认把一段对话（空行之间的连续句子）放进一个请求，用 `mode: "conversational"`，轮次衔接更自然。一个请求最多 2 个说话人，而且只能用库里的音色（30 个 studio 音色或 `voices list` 里的 id）。用了设计出来的 `voice_…`，或者超过 2 人时，自动改成一句一个请求，插话也随之去掉；
- 同一段里不能混着没有标签的旁白：旁白和对话之间空一行，分成不同的段；
- 用 `say` 等出草稿时，第 3 个参数写 `A=Tingting,B=Meijia`，覆盖 `@speakers` 里的音色。

实测（2026-09-30，Kore 和 Puck，上面这 3 句）：一个请求出 8.6 s，行边界靠词级时间切回每一句。对这段音频再做一次说话人分离，结果是 A 问、B 答，B 说话中间 A 插了一声"呃？"，A 再接一句，和稿子一致。英文对话里用音色库 id（`en-gb-storyteller-2`）和 studio 音色（Charon）搭配也能用。


### 整段合成（`--join block|all`）


`--join block` 把空行之间的连续几句放进一个请求，`--join all` 把整份稿放进一个请求（gemini 单个请求最多 8,192 个输入 token）。句与句之间的语气是连着的，比一句一句拼起来自然。行边界从词级时间反推，所以会自动打开 `--align gemini`，`vo/<lang>/NN.wav` 是从整段音频里切出来的。其他 provider 也能用，只是把几句拼成一段文字去念。`minimax` 例外：句间插 `--gap` 秒的停顿标记，行边界用它自己返回的逐字时间，不用转写（见下文"MiniMax"）。

代价是没法逐句控制：
- 某一句念得不好，只能整段重跑；
- 卡拍只作用在每段的开头（用这段第一句的 `@id:grid`），段内各句的间距由模型自己念出来，不能对到拍点上；
- 每句的 `[指示]` 仍然生效（gemini 把每句作为一个带 style 的 turn），但前后句的语气会互相带。只有一两句带指示时，这几句容易和其余的不一样；单人旁白要整篇一个声音，就都不写（`playbook/04-audio.md` 的"旁白要导演"）。

所以动效类、要卡拍的片子用默认的逐句合成；讲解、纪录片这类跟着语义走的旁白，可以整段合成。实测：两段共 3 句，第一段 2 句一次出 11.5 s，第二段单独放到网格上，三句相似度都是 1.00。


### 音色（`bin/vh voices`）


- `bin/vh voices`：音色库概览。库里有 2,089 个音色，分布在 30 个语言区域，**没有标成中文的**。这不影响中文旁白：TTS 按文本识别语言，30 个 studio 音色都能说中文（Kore、Charon 已实测）；
- `bin/vh voices list en-GB --gender female --search narrator`：按语言前缀、性别、关键词筛选。`--search` 由服务端匹配名字和描述，所以 "Kore" 也会匹配到 "Korean"。标 `*` 的是 studio 音色；
- `bin/vh voices design "<1–2 句描述：年龄、性别、音色质感、口音、基本语气>" --lang zh-CN --gender male --out audio/voice.wav`：生成一个存在项目里的音色，打印 `voice_…` id，并把试听样音存到 `--out`。之后用 `bin/vh tts <p> gemini voice_…`。每个项目最多存 200 个音色，保存 1 年；不用了就 `bin/vh voices delete voice_…`。实测：一次设计 20.7 s，输入 256、输出 1,077 token（付费档约 $0.01），样音 33.6 s，说的是普通话；
- **音色复刻**（replication）：官方支持用 10–30 s 的参考录音复刻一个人的声音，但必须同时上传**同一位成年说话人**亲口念的同意声明（中文是"我是此声音的拥有者并授权谷歌使用此声音创建语音合成模型"），服务端会核对两段是不是同一个人。这一步涉及本人授权，本仓库没有封装。需要时在 Google AI Studio 里做，把得到的 `voice_…` id 交给 `bin/vh tts`。


### Gemini 的费用、限制和标注


- **费用**（Standard 档，每百万 token）：Flash TTS 输入 $0.50、输出音频 $9（约 $0.00225 / 10 s）；Flash-Lite TTS 输入 $0.50、输出 $6（约 $0.0015 / 10 s）。这是 2026-12-31 之前的价格，**2027-01-01 起全部翻倍**（Flash $1 / $18，Lite $1 / $12）。Batch 和 Flex 档是一半。免费档不收费，但内容可能被用来改进 Google 的产品，有保密要求的稿子用付费档；
- 单个请求最多 8,192 个输入 token；
- **转写的配额**（`--align gemini`，2026-10-01 在 Tier 1 上）：`gemini-3.5-transcribe` 每分钟 10 次、每天 100 次，官方文档说按项目算，不按 key。每分钟的 429 会自动等；每天的用完了会直接失败，报错里写出是哪一项日配额。日配额的 429 也可能只要求等几十秒，所以不看等多久，看 429 里列出的配额：`google.rpc.QuotaFailure` 的 `quotaId` 带 `PerDay`（例如 `GenerateRequestsPerDayPerProjectPerModel`）就是日配额。没写明配额的 429，要求等 90 s 以上才当成日配额，不到 90 s 的照样等了再试，每次调用最多 5 次。转写用不了时怎么办，见 `playbook/04-audio.md` 的"转写用不了时"。额度恢复后用 `--resume` 接着跑，已经转写成功的句子（`vo/<lang>/*.asr.json`）不会重做。每天几点恢复没有定论：文档写太平洋时间零点，429 提示里的倒计时指向 UTC 零点。AI Studio 的用量页显示的是 28 天的峰值，不是今天还剩多少；
- **语气写短**：`--instruct` 和 `[指示]` 最后都进 `speech_metadata.style`。官方建议只写这一句的情境语气（"压低声音，卖个关子"）；年龄、性别、口音这类身份特征不要写进 style，要换音色，或者用 `voices design` 做一个。长篇的"角色设定""导演笔记"是音色漂移最常见的原因；
- **每段 Gemini 音频都带 SynthID 水印**（听不出来，但能检测到）。用了 Gemini 旁白的片子，在项目 `NOTES.md` 里写明"旁白为 AI 合成（Gemini TTS，含 SynthID 水印）"，发布时按平台要求标注。

### MiniMax（`minimax`）

```bash
bin/vh tts projects/<p> minimax "Chinese (Mandarin)_Reliable_Executive" zh --join all   # 整份稿一个请求
MINIMAX_TTS_SPEED=1.25 bin/vh tts projects/<p> minimax - zh --join all --gap 0.3          # 默认音色，语速 1.25，句间停 0.3 s
```

- **key 和接口**：请求发到国际站 `https://api.minimax.io/v1/t2a_v2`。key 只从环境变量读，先找 `MINIMAX_TOKEN_PLAN_KEY`（Token Plan 的 Subscription Key，花的是买的 Credits），没有再用 `MINIMAX_API_KEY`（按量付费，账户没有余额时报 `1008 insufficient balance`）。买了 Credits 却只设了按量付费的 key，也是 1008。国际站的 key 发到国内站 `api.minimaxi.com` 会报 `2049 invalid api key`，所以默认走国际站；用国内站（platform.minimaxi.com）的 key 时，设 `MINIMAX_BASE_URL=https://api.minimaxi.com`。报错只写 key 来自哪个变量，不写 key 本身；
- **音色**：`--voice` 写系统音色的 id。中文音色都以 `Chinese (Mandarin)_` 开头，例如 `Chinese (Mandarin)_Reliable_Executive`（沉稳的中年男声，默认）、`_News_Anchor`（女声新闻主播）、`_Male_Announcer`、`_Radio_Host`；英文默认 `English_expressive_narrator`。全部系统音色（2026-10-07 有 332 个）用 `POST /v1/get_voice`、body `{"voice_type": "system"}` 列出，`bin/vh voices` 只管 Gemini：

  ```bash
  curl -s https://api.minimax.io/v1/get_voice -H "Authorization: Bearer $MINIMAX_TOKEN_PLAN_KEY" -H "Content-Type: application/json" -d '{"voice_type":"system"}' | python3 -c 'import json,sys; [print(v["voice_id"], "|", v.get("voice_name", "")) for v in json.load(sys.stdin)["system_voice"]]'
  ```

  id 里有空格，命令行里要加引号；也因为有空格，写不进 `@speakers`，双人对话暂时用别家；
- **参数**：`MINIMAX_TTS_MODEL`（默认 `speech-2.8-hd`）、`MINIMAX_TTS_SPEED`（语速 0.5–2，默认 1）、`MINIMAX_TTS_VOL`（音量 0.01–10，默认 1）、`MINIMAX_TTS_PITCH`（音调 −12–12，默认 0）。超出范围在合成前就报错。这几个值记在 `vo/<lang>/_run.json` 里，`--resume` 时和那次不一样就拒绝。`language_boost` 按 `--lang` 给 `Chinese` 或 `English`，`text_normalization` 打开（数字、符号按念法读，见下面的"年份"）；
- **语气**：MiniMax 不听一句话的导演指示，只认一个情绪词：`happy`、`sad`、`angry`、`fearful`、`disgusted`、`surprised`、`calm`、`fluent`、`whisper`。`--instruct` 和 `[ ]` 里写这些词才有用（两处都写了情绪词时取 `[ ]` 的），别的文字会被忽略，命令提示一次。整段合成时只用 `--instruct`，逐句的 `[ ]` 不进请求；
- **词级时间不用转写**：请求时打开字幕（`subtitle_type: word`），MiniMax 返回每个字的起止（毫秒）。`bin/vh tts` 把它们拼回稿子的写法：中文一字一个 word，英文一词一个，"1953" 这样的数字是一个 word，覆盖它念出来的全部音节，`@pronounce` 里的词也一样。所以 timeline 里直接有 `words`，`bin/vh captions` 可以逐字出字幕；`--join` 也不会因此打开转写，不要 `GEMINI_API_KEY`。想要 ASR 对稿时照样可以加 `--align gemini`：整段合成时每段转写一次，相似度按句算，句子的起止仍用 MiniMax 的时间；
- **整份稿一个请求，音色不漂**：逐句或逐段分开合成时，段与段之间能听出像换了个人。`--join all` 把整份稿放进一个请求（不超过 10,000 字符，中文旁白约半小时），从头到尾是同一口气，讲解、纪录片这类旁白推荐这样做。句与句之间插一个 `--gap` 秒的停顿标记（默认 0.25 s），再按 MiniMax 的逐字时间把每句切回 `vo/<lang>/NN.wav`。代价和"整段合成"一节一样：不能单独重念一句，也不能逐句卡拍。这时 `--gap` 已经写进了请求，`--resume` 不能改它（别的时间参数照样可以改）；整段音频和它的逐字时间（`_blockNN.words.json`）都在，才算这一段做完。一个请求超过 10,000 字符时，命令在删掉上一次的配音之前就报错；
- **停顿标记**：句子里写 `<#0.4#>`（秒，0.01–99.99），MiniMax 在那里停 0.4 s；字幕和其他 provider 都会去掉它。写在一句开头或末尾的标记，加到这一句和前后一句之间的停顿上：同一个请求里加进连接两句的停顿标记，分开的请求之间加进静音，逐句、分段、整段合成都一样。比如一段讲完想多停一会儿，就在这段最后一句末尾写 `<#0.5#>`。第一句前面和最后一句后面的标记会被丢掉；连着写的几个标记合成一个（MiniMax 不接受连续的标记）；
- **发音词典**：人名、多音字念错时，在 `script.txt` 里加一行 `@pronounce 硖合/(xia2)(he2)`（拼音加声调数字，一个字一组括号；英文词可以写 `omg/oh my god`），可以写多行，不带空格的几条也可以写在同一行。没有 `/` 的 `@pronounce …` 仍是一句 id 为 pronounce 的旁白。它们进请求的 `pronunciation_dict.tone`，只对 `minimax` 生效（gemini 没有发音词典，要改写成同音字）。改了词典，`--resume` 会拒绝，要重新合成；
- **年份会被念成数**：开着 `text_normalization`，"1953 年"念成"一千九百五十三年"。送去合成的文字里，年份写成"一九五三年"。2001、2003 念成"两千零一""两千零三"，可以接受。`script.txt` 的文字同时是字幕，字幕要显示"1953 年"时，按 `playbook/04-audio.md`"写念法"的办法单独处理那一句；
- **计费**：按字符算（响应里的 `usage_characters`）。实测一个汉字算 2 个，字母、数字、标点、空格和停顿标记各算 1 个；
- **实测**（2026-10-07，`speech-2.8-hd`）：
  - 三句中文 `--join all`：一个请求，整条命令约 9 s，出 10.3 s 音频，三句的起止和逐字时间都来自字幕；句中 `<#0.4#>` 处实际停了约 0.8 s（加上逗号自己的停顿）；
  - 逐句合成时，每句前后各有约 0.3 s 空白，会被自动裁掉；
  - 一支片子里 `Chinese (Mandarin)_Reliable_Executive` 在语速 1.25 下约 5.35 字/秒（说话时）。

### 旁白里的标签

- **停顿标记**：`<#0.4#>` 是 MiniMax 的停顿（秒），只有 `minimax` 会停，其他 provider 和字幕都会去掉它，见上一节。
- **标签**：`<short pause>`、`<long pause>`、`<breath>`、`<laugh>`、`<sigh>` 可以直接写进句子里。只有 `gemini` 会演出来；其他 provider 和字幕都会自动去掉。去掉的规则：这 5 个和 `<cough>` 一律去掉；别的 `<词>` 只要不是两边都紧贴字母或数字，也当标签去掉，所以 `x<y and y>z` 这类式子会原样保留。中文稿里也写英文标签，官方说这样效果最好。标签只管某一刻的动作（停顿、呼吸、笑），持续的语气写在 `[ ]` 里。

## 外来音乐的节拍（`beats`）

外来音乐跑 `bin/vh beats` 时，除了 `bpm`、`offset`、`beats`、`downbeats`，还会得到三组带 `strength`（0–1，1 表示达到这首曲子前 10% 的强度）的重音：
- `hits`：所有 onset 的峰值，用来摆音效和画面上的重音；
- `kick`、`snare`：先用 librosa 的 HPSS 取出打击乐成分，再分频找 onset。40–150 Hz 当 kick；1.2–5 kHz 里频谱接近噪声的当 snare，hi-hat 和有音高的拨弦会被排除。加 `--no-drums` 跳过这一步。

精度按 ±1 帧设计（30 fps 下 33 ms）。在两段合成鼓 loop 上实测（击打时间已知，带 ±8 ms 的人为抖动，叠了 bass 和 pad）：
- kick：平均误差约 0 ms，最大 5–19 ms；
- snare：平均 +2.5 ms，最大 6 ms；
- hits：平均 +4 到 +7 ms，最大 23 ms。

三组都在 1 帧以内，没有漏检；误检的 strength 都不超过 0.12，滤掉 0.2 以下的就干净了。已知的局限有两条：
- 和 kick 同一音区的拨弦 bass 会被当成 kick（`bin/vh music --example` 的曲子上有 77 个这种误检），tom 也会；
- 切分节奏的曲子，BPM 可能报成一半（两段测试 loop 都是）。

所以硬切之前，先对照一下拍子。

## `score.json`：配乐的写法

`score.json` 的写法见 `bin/vh music --example`：
- 顶层：`bpm`、`key`、`mode`；可选 `meters`，例如 `{"11": 6}` 让整首的第 11 小节（从 1 数）变成 6/4，其余默认 4/4；可选 `beats_per_bar`，改整首的默认拍数，写 3 就是三拍子；
- `sections[]`：`bars`、`chords`（罗马数字）、`layers`（kick clap hats bass pad arp lead，以及 bell zheng dizi taiko）、`energy`（0–1）；
- 段落的特殊效果：`riser`（上升音推向下一段；写成 `{"gain_db": -6}`，或在 `true` 旁边加 `"riser_db": -6`，可以把它调低，免得盖住旁白或画面上的重音）、`impact`（段首冲击）、`fill`（最后一拍留白）、`bend`（古筝每两小节收在一个按弦上滑的音上）；`stop`（段内停顿，只作用于 parts）；
- `parts[]`：乐器声部；`motifs`：一次写好、到处调用的动机；还有 `stereo`、`space`、`swing`、`lofi` 等总线设置。都见下文"乐器声部"。

输出的 `music.beats.json` 包含 `sections`、`beats`、`downbeats`、`hits`，引擎直接读它来切镜和打点。写了 `meters` 时还会多一个 `bars` 数组，每项是 `[小节号, 起点秒数, 本小节拍数]`，画面用同一个 `bar(k)` 取小节位置。加拍时要让配乐和画面一起改：介绍片第 11 小节就是这样多停了 2 拍，其他秒数一个都不用手改。

**按音符驱动画面（`note_map`）**：声部上写 `"note_map": true`（只认声部本身，`by_section` 里写的不算），节拍表里会多一个 `notes` 数组，这些声部的每个音一条 `{"t", "end", "midi", "vel", "part"}`，按 `t` 排好；所有音都被段落停顿截掉时，它是一个空数组。
- `t` 是这个音落下的时间，和 `hits` 同一个口径：算进 `humanize`，`onset_ms` 提前的量补回来。`end` 是同一个时钟上的松键时刻：谱面上的时值，被段落停顿截短的也算进去，不会早于 `t`；钢琴、拨弦的余音会响过它。
- `part` 是声部的 `id`，没写 `id` 时是 `乐器名#序号`（同一种乐器里第几个没写 id 的声部，从 0 数），和 hits 用的名字一样。
- 和弦每个音一条；无音高的鼓 `midi` 是 null，有奏法时多一个 `art`（`o` 开镲、锣鼓经的字……）；`detune` 过的音是小数（E5 加 25 音分是 76.25）；轮指按每一次击弦列出，扫弦按每根弦列出。
- `vel` 是击弦的力度：算进声部的 `vel`、段落里的 `vel_ramp` 和 `humanize`，不算 `gain_db` 和渐强渐弱，所以可能大于 1。
- `--length` 截短时，片尾之后才开始的音去掉，跨过片尾的截到片尾。
- `bin/vh qa` 不读 `notes`：这些音也要做 cue check 时，在声部上再写 `"hit": true`。
- 不写这个字段的谱子，WAV 和节拍表一个字节都不变（风格样片和 showcase 的 32 份配乐重渲逐字节对比过）。

用法见 `08-vfx-and-motion-sources.md` 的"声画联动的接法"：琴键在 `t` 按下、在 `end` 抬起，角色的脚在 `t` 落到 `midi` 对应的那个键上。

**中国风的四种音色**是为中国题材加的，用法和其他层一样写进 `layers`：
- `bell`：类编钟。泛音不成谐波（含一个高小三度的"侧鼓音"），带慢拍频，余音很长。每小节强拍敲一下，能量高时小节中间再敲一个高音。
- `zheng`：古筝，用 Karplus–Strong 拨弦，弹八分音符的五声音型（能量低于 0.5 时只弹四分）。段落加 `"bend": true` 后，每两小节的最后一拍换成按弦上滑：拨弦后 0.12 s 开始滑上一个五声音级，再带一点揉弦。
- `dizi`：笛子。正弦加三角波，带通噪声做气声（比乐音低约 18 dB），颤音延迟进入，长音前加倚音，两小节一句。
- `taiko`：大鼓。音高下滑的正弦加鼓皮噪声。每两拍一个重击，能量高时加八分音符的接鼓；带 `riser` 的段落，最后两拍滚奏进下一段；`fill` 同样会空出最后一拍。

旋律类音色都走调式的五声音阶：`minor` 用羽调（1 ♭3 4 5 ♭7），`major` 用宫调（1 2 3 5 6）。其他调式（dorian、mixolydian 等）里，layers 和 parts 用同一套和弦根音；调式里有小三度就用羽调，否则用宫调。四种音色共用一个单独的混响（RT60 约 2.8 s），不跟 kick 一起抽吸。每个音符用独立的种子流，所以加减一种音色不会改变其他层的声音。`bin/vh music --example zh` 是一份 D 羽调、84 BPM、约 60 s 的起步谱，两次渲染的 md5 相同，峰值 −1.0 dBFS。

**乐器声部（`parts`）**：`layers` 只有一套合成音色，所以不同风格的配乐听起来都差不多。要真的换一种声音，就在 score 里加 `parts`：每个声部是一件乐器，按一个节奏型演奏，和 `layers` 一起渲染。只写 `layers` 的旧谱子和以前逐字节相同。`bin/vh music --instruments` 列出全部乐器和伴奏型，每个一行，带默认参数；`--example list` 列出起步谱：jazz、waltz、chip、lofi、guqin、trap。

- **乐器**（纯代码合成，不用采样，详见 `tools/audio/instruments.py`）：
  - 键盘：`piano`（`tone: felt` 是柔和的毡锤钢琴，`pedal` 延音）、`epiano`（Rhodes）、`harpsichord`、`celesta`、`musicbox`、`glockenspiel`、`toypiano`、`organ`（拉杆风琴，`tone: pipe` 是管风琴）；
  - 敲击旋律：`marimba`、`xylophone`、`vibraphone`（带电机颤音）；
  - 拨弦：`nylon`、`ukulele`、`harp`、`pizzicato`、`upright`（走路贝斯用的低音提琴）、`pipa`、`guqin`（滑音、吟猱、泛音；泛音和同音高、同力度的拨弦一样响）、`balalaika`、`cimbalom`。`celesta`、`musicbox`、`glockenspiel`、`toypiano`、`marimba`、`cimbalom`、`guqin` 都接受 `damp`：音符结束时止住余音；
  - 物理建模拨弦（可选，和上面的音色并存，只把 `inst` 换个名字就能 A/B）：`guqin_pm` `pipa_pm` `harp_pm` `nylon_pm` `ukulele_pm` `upright_pm` `balalaika_pm` `cimbalom_pm`，另有新乐器 `guitar`（钢弦民谣吉他）、`koto`（箏）、`shamisen`（三味线，`buzz` 0–1 是 sawari 蜂鸣，拨得越重越响）、`banjo`、`kalimba`、`musicbox_pm`。弦是数字波导，卡林巴和八音盒是悬臂梁的模态合成：一个音里音高可以连续滑动，高次泛音先衰减，重拨时音头略高再回落，琴体是一组共鸣模态。弦的奏法写在 params 或音符的第 5 格：`slide`、`bend`（半音，±36）、`vib`（颤音：音分，或 `[Hz, 音分, 延迟秒]`）、`yin`、`nao`、`harm`（节点泛音：`true` 或第几泛音 2–8，和同音高、同力度的拨弦一样响）、`trem`（轮指：同一根弦反复拨，写 Hz（最多 40）或 `true`）、`pos`（拨弦点 0.03–0.5）、`bright`（0–1）、`decay`（余韵倍数 0.02–20）、`ring`、`damp`、`mute`，超出范围的值会被夹到范围内；声部的 `tremolo` 照旧可用。`kalimba` 和 `musicbox_pm` 只认 `ring`、`damp`、`decay`。余韵最长渲染到各音色的上限（2.5–8 s，卡林巴和八音盒 5 s；`decay` 会把它拉长，最多 20 s），到上限还没衰减完的音在最后一秒淡出。每个音的峰值都一样；旧音色只校准了参考音，越往高音越弱，所以从旧音色换过来，默认八度的音量差不多（±5 dB），往高走会响出来，高三个八度时响 6–26 dB（cimbalom 26、balalaika 17、pipa 16、ukulele 15、upright 13），换完要重新听一下 `gain_db`；
  - 拉弦：`strings`（弦乐组，`marcato` 是短促有力的奏法）、`violin`、`fiddle`、`cello`、`banhu`。独奏乐器是单音的：间隔不到 40 ms 的音连成一句，会滑过去，有揉弦；要每个音都重新起音，写 `"retrigger": true`（放在 params、某一段的 params，或单个音的奏法里）；
  - 管乐：`flute`、`xiao`、`whistle`、`suona`、`sheng`；铜管 `brass`（`stab` 短促、`swell` 渐强、`mute` 弱音器），`braam`（《盗梦空间》式的低音铜管轰鸣）；
  - 合成器：`pulse`（芯片方波，`duty` 占空比，`chiparp` 快速琶音当和弦）、`triangle`（4-bit 三角波贝斯）、`sq_bass`、`sub808`（带滑音和失真；和独奏弦乐一样，紧挨着的音会连成滑音，要一下一下地打就写 `"retrigger": true`）、`seq`（`attack` 给音头一点起音，滤波开得很大时 qa 就不会把音头当成 click）、`cs80`、`drone`、`polysynth`；旧的 `layers` 音色也能当声部用：`saw_pad` `saw_lead` `bell` `zheng` `dizi` `taiko` 等；
  - 鼓和打击乐：`kick` `snare` `rim` `brush`（刷子，`o` 是扫）`ride` `hihat`、`bb_kick` `bb_snare`（boom-bap）、`trap_hat` `trap_snare` `clap` `gated`（合成波门限混响军鼓）、`cowbell` `shaker` `bongo` `conga` `woodblock`、`bangzi` `gong` `smallgong`（小锣，音高上扬）`cymbals`（铙钹）`danpigu`（单皮鼓）、`framedrum` `timpani` `clock` `metal` `noiseburst` `scratch`（搓碟）`noise` `chipkick`；`luogu` 直接读锣鼓经的字：仓 才 台 七 令 顷 冬 大 八。大锣默认从 240 Hz 往下滑，用 params 的 `daluo`（Hz）改音高，或者给声部写 `"pitch"`（例如 `"d1"`）让它跟着调走；小锣用 `xiaoluo`（Hz）；
  - 底噪：`vinyl`（黑胶噼啪）`tape`（磁带嘶声）`hum`（50/60 Hz 电源嗡声加风扇）`wind` `rain` `roomtone`，在声部所在的段落里连续铺满。
- **步进网格**：`"pattern": "x...x...x...x..."`，一个字符一步，默认 16 分音符（`"step": 8` 是八分，`12` 是八分三连）。字符的含义：
  - `X` 重音，`x` 普通，`g` 幽灵音，`1`–`9` 力度 0.1–0.9；
  - `o` / `O` 是这件乐器的另一种打法：开镲、边击、拍面、ride 的碗、刷子的扫、闷掉的铙钹；
  - `r` 滚奏（一步里 2 下），`R` 滚 3 下，`f` 装饰音（flam）；
  - `~` 把上一个音延长一步，`.` 休止；空格和 `|` 只为好读，不计。

  小节长短不一时，每小节从头读：短了循环，长了截断。所以 `"x...x...x...x..."` 在 3 拍小节里打 3 下，在 2 拍小节里打 2 下。起点落在小节里的那一步照样发声，只是被小节线截短：二分音符（`"step": 2`，或伴奏型的 `"rate": 2`）在 5 拍小节里是 3 个音，最后一个只剩一拍；在 1 拍小节里也有 1 个音。要按拍数换节奏，就写成字典，值可以是网格，也可以是一小节长的音符表：`{"3": "x...x.x.....", "*": [[0, 1, "c0"]]}`；写成列表则一小节一条，依次循环。
- **音符表**：`[[拍, 时值拍数, 音高, 力度, 奏法], …]`，拍从本小节的强拍数起，`"loop": N` 让一张表跨 N 小节。N 数的是这个声部自己的小节（它所在的那些段落），不是整首的拍数。有的音从来落不进任何一个小节（例如 `loop` 写短了）时，渲染会警告。拍位可以是负数：`[-0.5, 0.5, "d5"]` 是弱起，落在强拍之前半拍，即使这个声部不在前一段里也照样发声，但不能早于整首的开头。弱起在每个 `loop` 窗口之前都响一次，默认 `loop` 为 1 时就是每小节之前都响，所以带弱起的表要把 `loop` 写到整句的长度；弱起音的 `c`、`s` 记号按它引入的那一小节的和弦算。音高记号都相对"那一刻的和弦"和声部的八度：
  - `c0` `c1` `c2` 是和弦的根音、三音、五音，`s1` `s-2` 是从根音起的音阶步数，`d1`…`d7` 是调式音级；
  - `+7` 是根音上方七个半音，`D4` 是绝对音高；
  - 后缀 `'` 升八度、`,` 降八度。

  `"scale"` 可以换音阶：`penta`（大调用宫、小调用羽）、`gong shang jue zhi yu`、`dorian`、`harmonic` 等。和弦多了 `V7`、`Imaj7`、`iiø7`、`bVII`、`Vsus4` 这类写法，同一格写两个（`"ii7 V7"`）就是一小节换两个和弦。
- **动机（`motifs`）**：一个乐句只写一次，在别的段落、别的乐器上调用和变形。顶层写 `"motifs": {"A": {"notes": [[0, 1, "d1"], [1, 2, "d5"], [3, 1, "d4"], [4, 1, "d3"]]}}`，音符表里写 `{"motif": "A", "at": 8, "shift": 1}`，这个调用就在原处展开成普通的音；整个 `pattern` 也可以只写一个调用。常用的发展手法各是一两个键：
  - 模进：`"repeat": 3, "every": 4, "shift_each": 1`，每遍高一级；
  - 应答：`"shift": 2` 换到别的音级上，或 `"invert": true` 倒影；
  - 碎片：`"take": 3` 只取前 3 个音；
  - 扩大：`"augment": 2` 放慢一倍，`"diminish": 2` 是紧缩。

  全部变形、执行顺序和写法见 `tools/audio/motifs.py` 开头的说明，下面有一个完整的例子。
- **伴奏型**（`"figure"`）：
  - `walking` 走路贝斯：强拍根音，最后一拍半音接进下一小节；
  - `oompah` / `waltz`：低音在 1 拍，和弦在其余拍。2、3、4 拍的小节都能用；用 `"role": "bass"` 和 `"role": "chord"` 分给两件乐器。低音比声部的 `c0` 低一个八度：`"octave": 3` 时低音落在第 2 个八度（D 小调是 D2，约 73 Hz），`"octave": 2` 就掉到 D1（约 37 Hz），笔记本扬声器上听不见。所以只弹低音的声部写 3，见下面的华尔兹示例；
  - `strum` 扫弦，`D` 下扫、`U` 上扫、`x` 闷音；
  - `alberti`、`arp-up`、`arp-updown` 是键盘分解和弦；
  - `ostinato` 反复一个音型，跨小节线接着走；
  - `tremolo` 轮指、颤奏（琵琶、巴拉莱卡）；
  - `sustain` 每个和弦一个长音（`"hold": "section"` 整段一个长音，适合 drone）；
  - `stab` 在指定拍上短促的和弦；
  - `roots` 按固定节奏弹根音（`"octaves": true` 是合成波的八度贝斯）；
  - `melody` 是按种子生成的占位旋律，只用来打草稿。
- **律动**：`"swing"` 写 0–0.33 或 0.5–0.75，两种写法都行。0–0.33 表示后半拍推迟的比例，0.33 约等于三连音 shuffle；0.5–0.75 表示前半拍在一拍中所占的比例，0.667 就是三连音。`"humanize"` 是带种子的微小时间和力度抖动。起音慢的乐器写 `"onset_ms"`，提前起音，让听到的起点正好落在拍上（铜管 stab 用 8 ms）。步长和摇摆单位对不齐的声部保持平直，不被拉歪，例如八分摇摆下 `step: 12` 的三连音。
- **按段落改写**：`by_section` 里写的覆盖只作用于那一段。跨几段的声部，给后面某一段写的列表（每小节一条的网格，或带 `loop` 的音符表）默认接着这个声部前面的小节往下数，可能不从这一段的第一小节开始，这时渲染会警告，并说出这一段是从列表的第几小节开始的。声部上写 `"index": "section"`（顶层写 `"pattern_index": "section"` 则对整首生效），列表和 `loop` 就都从每段的第一小节数起。`"figure": null` 让这一段改用声部的 `"pattern"`（例如整首是伴奏型，某一段换成音符表）。段落里的 `params` 对所有乐器都生效，包括单音乐器；参数一变，就从这里开始新的一句。段落里的 `gain_db` 是在乐器之后加的音量，不会推动乐器自己的失真（`sub808` 带 `drive` 时，−12 dB 就是 −12 dB），也不会改变音色。底噪声部认段落的 `gain_db` 和 `vel`，不认 `params`。段落里写的 `onset_ms`，节拍表里的 hit 也按它来算。
- **力度起伏**：
  - `"dyn": {"1": -12, "8:3": 0, "12": -6}`：声部在整首里的音量折线（dB），像推子一样作用在整个声部上，正在响的余音也跟着走。位置写 `小节`、`小节.拍` 或 `小节:拍`，小节按整首数；两点之间线性过渡，第一个点之前、最后一个点之后保持不变；
  - `by_section` 里的 `"cresc": [-8, 0]` 或 `"dim": [0, -12]`：这一段里按 dB 从第一个值走到第二个值。这一段里声部发出的所有声音都跟着这条线走，从前面延续过来的长音也一样；段落结束后，还在响的音保持终点的音量，余音不会弹回去，之后新起的音按它自己的音量。`"vel_ramp": [0.6, 1.0]` 按音在段内的位置缩放力度，音色也跟着变亮，比只调音量更像真的渐强；
  - 单个长音的渐强、渐弱：奏法里写 `{"to": 0.9}`，这个音的力度在时值内直线走到 0.9，然后保持。轮指的每一下也跟着走。`dyn`、`cresc`、`dim` 是 dB 上的直线，发夹是力度上的直线；
  - 渐强写到 0 dB 为止，不要往上加：整首最后按峰值归一化，某一段推到 +12 dB，其余段落就会整体低下去差不多这么多，顶上还会被软削波压平；
  - 音量的台阶都在 10 ms 内滑过去，不会出咔嗒声。
- **段落停顿（`stop`）**：段落上写 `"stop": {"at": "5:2", "keep": ["pad"], "tail": 0.15}`，从这一段第 5 小节第 2 拍（小节按这一段数）到段尾，只有 `keep` 里的声部（写 id 或乐器名）接着演奏。其余声部不再发新音，正在响的音（包括长音）从停点起在 `tail` 秒内淡出，默认 0.15 s，最短 5 ms；延迟和混响的尾巴照常响完；底噪暂停，下一段照常回来；引入下一段的弱起照常演奏。写 `"hold": true` 则让正在响的音自然响完；`"stop": true` 是从段首起全停。停点按网格算，不受 `humanize` 的抖动影响。节拍表里会多一个 `stop:段落名` 的 hit，画面可以在这里卡点。这就是 `playbook/04-audio.md` 说的"屏息"：`keep` 里留一层底，不要做成数字静音。
- **总线**：
  - `"stereo": true` 输出立体声，每个声部有 `pan`；默认仍是单声道；
  - `"space"` 选混响：`dry room plate hall cathedral gated`，声部用 `"send"` 送进去；
  - `"lofi"` 加黑胶噼啪、抖晃和低通，`"tape"` 是磁带饱和。`lofi` 的 `lp` 低于 6 kHz 左右，hi-hat 就没了，因为它的声音都在这个频率之上。可听度检查量的是进总线之前的声部，看不到这个低通，所以不会提醒你：`lp` 保持在 6 kHz 以上，或者把 hat 调响；
  - 声部级的效果有 `delay`（例如 SNES 回声）、`duck`（被 kick 压，做合成波的泵感）、`lp` / `hp`、`drive`。

**写法示例**：

```json
"swing": 0.3,
"parts": [
  {"inst": "upright", "figure": "walking", "ghost": 0.2},
  {"inst": "ride", "pattern": "X.xx", "step": 8, "gain_db": -9, "pan": 0.35},
  {"inst": "brush", "pattern": {"3": "o~x~o~", "*": "o~x~o~x~"}, "step": 8, "gain_db": -6},
  {"inst": "brass", "figure": "stab", "beats": [0, 1.5], "params": {"stab": true, "mute": true}, "onset_ms": 8}
]
```

这是冷爵士：走路贝斯、ride 加刷子、弱音铜管的短促和弦，八分音符摇摆，3 拍的小节也照样成立。

```json
{"inst": "guqin", "scale": "yu", "loop": 2, "send": 0.35, "pattern": [
  [0, 1.5, "s0"], [1.5, 0.5, "s2", 0.6, {"slide": -2}], [2, 2, "s4", 0.7, {"yin": true}],
  [4, 2, "s3'", 0.6, {"harm": true}], [6, 2, "s1", 0.7, {"bend": 2}]]},
{"inst": "luogu", "pattern": "仓.才.台.才.仓.七.台台仓.", "gain_db": -6}
```

古琴的滑音、吟、泛音、按弦上滑都写在单个音的奏法里；锣鼓经直接写字。

```json
"beats_per_bar": 3,
"parts": [
  {"inst": "pizzicato", "figure": "waltz", "role": "bass", "octave": 3},
  {"inst": "strings", "figure": "waltz", "role": "chord", "octave": 4, "gain_db": -8}
]
```

三拍子华尔兹：拨弦低音在 1 拍，弦乐和弦在 2、3 拍。低音声部写 `"octave": 3`，低音落在第 2 个八度；写 2 会低到听不见。

```json
"motifs": {"A": {"notes": [[0, 1, "d1"], [1, 2, "d5"], [3, 1, "d4"], [4, 1, "d3"]]}},
"parts": [
  {"inst": "violin", "sections": ["theme"], "octave": 4, "loop": 4, "pattern": [
    {"motif": "A"}, {"motif": "A", "at": 8, "shift": 1, "vel": "+0.1"}]},
  {"inst": "brass", "sections": ["develop"], "octave": 4, "loop": 4, "by_section": {"develop": {"cresc": [-8, 0]}},
   "pattern": [{"motif": "A", "take": 3, "repeat": 3, "every": 4, "shift_each": 1, "vel_each": "+0.05"}]},
  {"inst": "celesta", "sections": ["coda"], "octave": 5, "loop": 4, "pattern": {"motif": "A", "augment": 2}}
]
```

一个动机走完三段：小提琴先陈述，再高一级、响一点重复一遍；发展段的铜管取它的前 3 个音做模进，每遍高一级、响一点，整段渐强 8 dB；尾声的钢片琴把它放慢一倍。改 `A` 里的一个音，三处一起变。

**电平**：`gain_db` 0 时，各乐器响度大致相当：单个打击或拨弦的峰值约 0.5，持续音约 −20 dBFS RMS，底噪约 −34 dBFS RMS（黑胶噼啪按峰值定，峰值约 0.2，RMS 更低）。起步可以按这个范围写：
- 主奏 0 到 −3；
- 和弦、pad −6 到 −12；
- 贝斯 0 到 −4；
- kick、snare −1 到 −6；
- 镲、沙锤 −8 到 −14；
- 底噪 −3 到 −9；
- `send` 0.1–0.4，大教堂混响可以到 0.6。

**每个声部都必须听得见**：一个音也没有的声部，或者最终文件里最响的 50 ms 低于 −40 dBFS 的声部，渲染会直接报错，并点名是哪个声部。响度按各声道功率的平均来量，硬声像的声部不会被低估；冲击类的底噪也可以按峰值减 18 dB 来算。这防的是"写了鼓却没出声"的静默故障。确实要很轻的声部，写 `"quiet": true`；但它管不了一个音都没有的声部。

**写错了会直接停下**：渲染前先检查一遍，写错时报出是哪个声部。检查的内容：
- 不存在的乐器、段落、混响空间、`duck` 对象，或 `by_section` 里的段落名；
- 重复的 `id`；
- 不是有限数字或超出范围的字段，例如 `pan` 超出 −1 到 1、`step` 小于等于 0；
- 不是 `[拍, 时值, …]` 的音符；
- 没有扫弦记号的 strum；
- 超出 MIDI 0–127 的音高；
- 写错的动机调用：没有这个动机，不认识的键、变形或调式，变形缺了参数，次数不是整数，片段一个音也不剩，`vels` 的个数和音数不一样，动机互相调用成环；
- 超出所在段落的 `stop`，`stop` 里不认识的键、不是 true / false 的 `hold`、`keep` 里不是任何声部的名字；
- 写法不对或重复的 `dyn` 位置，写在 `by_section` 之外的 `cresc`、`dim`、`vel_ramp`，写进 `params` 的发夹 `to`。

**确定性**：每个声部的随机流来自"种子 + 声部的 `id`（或乐器名和它是第几个同名声部）+ 音符序号"。加一个声部、删一个声部时，乐器不同或各有 `id` 的其他声部，stem 逐位不变（已验证：删掉 bongo、chipkick、hihat、framedrum，或在最前面插一个 shaker）。同一种乐器写了两个以上、又都没有 `id` 时，它们按先后编号：删掉前面那个，后面的就换一套随机流，声音跟着变。遇到这种情况渲染时会提示；给每个同名声部写上 `id`，声音就固定了。同一份谱子渲染两次，sha256 相同。

**老实说还做不到的**：
- 这是合成，不是采样。钢琴、弦乐组、铜管在笔记本扬声器上认得出来，凑近听仍然是"合成的"；独奏提琴的换弓和弓压变化是简化模型。
- 旧的拨弦音色用 Karplus–Strong，基频准，高次泛音略偏；古琴的泛音是近似纯音。物理建模的音色（`_pm` 结尾的，以及 `guitar`、`koto`、`shamisen`、`banjo`、`kalimba`）单根弦的基频误差在 ±1.2 音分以内，但琴体是合成的共鸣模型，不是从真琴测出来的脉冲响应，凑近听仍然是合成的。
- 旧音色 `saw_pad` 保留原样，失谐的锯齿波互相拍频，长音每秒起伏好几 dB，`qa` 可能报 pumping。新的 `strings`、`brass`、`drone`、`polysynth` 做了去拍频处理（弦乐组单音的起伏从 12 dB 降到 5 dB）。
- `braam` 和低音大提琴的锯齿波边沿会出现在 `qa` 的 click 警告里，这是设计出来的声音，不是故障。三味线的 sawari（`buzz`）每个周期拍一下琴码，拨得重时 `qa` 也会列出几处；`"buzz": 0` 就没有。
- 没有人声。
- 最耗时的是 `gong`、`luogu`、`braam`、`cs80`、`cimbalom`，每个新音约 0.05–0.3 s；物理建模的音色每个新音最多约 0.05 s，音高一直在动的长音（古琴的滑音、吟、猱）约 0.07–0.08 s；三味线因为 sawari 每个采样都走慢路径，一秒长的音在 MIDI 96 约 0.2 s，108 约 0.7 s，114 及以上约 1.4 s。一段 5 s、9 个声部的谱子，在 M3 Max 上约 1.5 s 渲染完。
- 内存：声部逐个渲染、混进总线后就释放。一首 7 个声部的立体声谱子，5 分钟峰值约 1.1 GB，10 分钟约 3.6 GB（macOS 的 peak memory footprint；RSS 会显示得更高，因为释放的页还挂在进程上）。展示片 20–81 s，用量在 0.5 GB 以内。
- 没有变速：整首只有一个 `bpm`，写不出渐慢、渐快和延长记号。要多停一会儿，只能用 `meters` 给某一小节加拍（介绍片第 11 小节就是这样）。

## 音效（`sfx`）的细节

- **`t` 是落点，不是起点。** 内置音效按各自的落点对齐到 `t`：riser、swish_rev、tape 在 `t` 结束；whoosh、whip、swoosh_tonal、air、paper 把最响的一段放在 `t`；shimmer 和小动作、命中从 `t` 开始。所以 riser 写在它要冲到的那一刻（drop、揭示、切镜），声音从 `t − dur`（默认 2 s）开始；写成铺垫开始的时刻，整段声音就早了一个 `dur`，峰值落在铺垫刚开始的地方。落点和能量峰之间的细差见下文"已知局限"。
- **`pan`**（−1 最左，0 居中，1 最右）用等功率声像律，并且按"居中 = 原电平"归一。不写 pan 的事件和以前的单声道摆放逐采样相同。pan = ±1 时，那一侧 +3 dB，总功率不变，所以大声的音效打到最边上时注意削波（工具会提示削波的采样数）。
- **`dist`**（≥ 1，单位是参考距离，1 = 原样）：电平乘 1/dist，距离每翻一倍 −6 dB；再加一个平缓的一阶低通，截止频率 16 kHz / dist，最低 1 kHz。低通带来的延迟不到 0.2 ms，落点不受影响。声速延迟没有加，因为 `t` 本来就是"该听到的时刻"；要做"先见闪光、后闻炮声"，自己把 `距离米数 / 343` 加到 `t` 上。
- **pan 从画面上算，不要凭感觉写。** 取发声物体在那一刻的屏幕 x：`pan = 2·x / 画面宽度 − 1`，再乘 0.7–0.8 收一点，全左全右在耳机里很刺。3D 场景用相机坐标：`pan = v·right / |v|`，其中 v 是声源到相机的向量；距离也从同一个 v 来。镜头在动时，同一个声源在不同时刻的左右位置也不同。Austerlitz 那支片子的音效就是这样从场景事件里算出声像和距离的，见 `cases/opus55-gallery.md` 第 6 节。
- **内置音效的种子和清单**：每个内置音效用自己的随机种子（按名字和 variant），同一个事件不管前面先渲染了什么，都得到同样的采样。`sfx lib` 写的是每个音效的 plain 版（variant 0），同时写一份 `sfx-lib.json`，记下每个 WAV 是哪个内置音效和它的 sha256。`--lib` 目录里列在清单上、哈希没变的 WAV 就是内置音效本身，照样按事件变化；其他 WAV（哪怕和内置音效同名）原样使用，不接受 variant 和塑形参数；清单上的 WAV 被改过，工具会点名提示。没有清单的旧目录按字节和今天的 plain 版比对，并提示一次重新跑 `sfx lib`。impact 和 boom 在命中点有一层 1–4 kHz 的起音（crack），身体晚 2 ms 进来：没有这一层时，它们 98–100% 的能量在 150 Hz 以下，手机和笔记本几乎放不出来。impact、boom、ding、success、glitch 的结尾有 50 ms 的升余弦淡出，riser 4 ms，tape 10 ms：以前尾巴是硬切的，qa 报过 1593 倍的 click。
- **每个事件默认是自己的 variant，一支片子里连成一条路。** 除了四个提示音，内置音效的每个事件都有一个 variant：同一支片子里同一个音效按时间顺序走一条有界的路，从一个起点（由音效名和这支片子用了哪些音效、各几次算出来，和时间无关）出发，每出现一次走一步。相邻两下一定不同，又不会差得太远，整支片子里像同一只手的动作在慢慢变化；不同片子的起点不同。同一份 events.json 每次渲染逐字节相同。variant 写成 起点·1000 + 第几步，例如 4821003。它只动事件没写的参数，幅度保持在"同一家族、换一个手势"：转场的长度 ±25 %、音高 ±3 个半音、峰值的位置、扫频跨度、明暗、音色、电平 ±1.5 dB；click、tick、pop 这类小动作只动一点音高、长度和电平；impact、boom 动起音（crack 的频段、衰减、电平，身体晚进来的时间）、衰减和电平，不动身体的音高（40 Hz 的身体一动音高就和配乐的低音拍出"抽吸"）。提示音不变，观众会记住它们的意思。只挪动事件的时间不会重抽（除非同一个音效的两个事件换了先后）；增删事件会重抽这支片子里没钉住的事件。想留住某一下，就写 `"variant": n`：`sfx place` 的 sidecar 和 `bin/vh mix … stems=DIR` 的 `meta.json` 里都记着每个事件拿到的号，`bin/vh qa --stems` 用它把同一个声音重新渲染出来；`"variant": 0` 是 plain 的那一个。
- **按动作给转场塑形。** 转场类内置音效都接受这几个可选字段：`dur`（跟着转场的长度走；不写 `pitch`、`center` 时，越长越低，长度每翻一倍低 4 个半音）、`pitch`（半音）或 `center`（Hz）、`dir`（`"up"` 上扫，`"down"` 下扫）、`bright`（−1…1，暗…亮）、`tone`（0 纯气流…1 带音高的共鸣）。任何音效都可以写 `pan_from`、`pan_to`，让声音跟着画面从一边划到另一边。小而快的动作短、高、亮，大而慢的动作长、低、厚。比如一张卡片从左往右快速划过：`{"t": 2.0, "sfx": "whoosh", "dur": 0.35, "pan_from": -0.6, "pan_to": 0.6}`；镜头慢慢退到大场景：`{"t": 6.0, "sfx": "whoosh", "dur": 1.2, "dir": "down", "tone": 0.4}`。其余内置音效只接受其中几项：typing 是 `dur`、`pitch`，riser 是 `dur`、`pitch`、`bright`，click、tick、pop、shutter、glitch、impact、boom 只有 `pitch`；四个提示音（ding、success、error、toggle）一项都不接受，`variant` 也不行，观众要靠同一个声音认出它的意思。写了不收的字段，`sfx place`、`bin/vh mix … events=` 和 `sfx audition` 都报错退出；`bin/vh mix` 这样退出时什么都不写，`mix.wav` 和 stems 还是上一次的，而 `bin/vh qa` 不一定会去渲染这个事件，照样能在旧混音上跑完（见下文"混音"里的"报错退出时"）。
- **重复会被提醒。** `bin/vh qa` 拿到事件表时会查：同一类声音（内置音效按名字；文件按去掉 `_a`、`_2` 这类编号后的名字）按时间连着 3 次以上听起来一样（逐字节相同，或者 150 Hz 以上的波形相关 > 0.98），就警告，不算失败，并提示去掉 variant 的钉、给每一下塑形，录音素材就轮换几条（A B C A B C 这样轮换不算重复）。判断靠测出来的相似度，不看 variant 号。提示音、`role: "signal"` 和 sonification 层本来就该每次一样，不查；渲染不出来的事件会列出来。
- **`role`**（可选：`hero`、`detail`、`ambience`、`signal`）：这个事件在混音 profile 里属于哪一类，什么时候要写见下文"混音"。`sfx place` 会检查它，并在输出旁边写一个 `<out>.events.json`：每个事件的类和原因、起点，以及它自己摆好后的电平（fast：最响 100 ms 的 K 加权响度；m400；tp：真峰值；len：持续时间；lf：150 Hz 以下能量占比），混音前就能读。

## 混音（`mix`）和混音报告（`qa mix`）的细节

**按视频类型选一个 profile，所有层都相对一个锚点放。** 有旁白时锚点是旁白（各句响度的中位数），没有旁白时是音乐（它 3 s 的短时响度，最低取整体响度下方 8 LU）。顺序是人声锚点 → 音乐 VMR → 音效分级 → 纵深 → 母带：
- 旁白逐句往中位数拉平（最多 ±3 dB）；
- 音乐逐句只压到目标 VMR（人声减音乐，LU），1–4 kHz 只挖词需要的深度，中文旁白连 250 Hz–1 kHz 一起挖；
- 每个音效向本类范围的中心走一半；
- 所有音效共用一个短房间；
- 母带是一个整体增益加真峰值限幅器。

各步的细节写在 `tools/audio/mix.py` 开头。

**按类型选 profile**（数值是相对锚点的 LU）：

| profile | 用于 | 锚点 | VMR 目标 / 正常范围 / 硬下限 | 挖让 SNR / 最深 (dB) | hero | detail | ambience | signal | 说话时 hero 最高 | 另外 |
|---|---|---|---|---|---|---|---|---|---|---|
| `explainer` | 01 原理讲解、06 论文 | 旁白 | 13 / 11–18 / 9 | 10 / 7 | −9…−2 | −18…−8 | −28…−16 | −12…−4 | 人声 −4 | |
| `short` | 02 知识短视频 | 旁白 | 11.5 / 10–16 / 8 | 9 / 6 | −7…−1 | −16…−7 | −26…−14 | −8…−2 | 人声 −3 | 没人说话时 hero 下音乐让 2 dB |
| `promo` | 03 发布片、05 数据故事、08 快剪 | 音乐（有旁白时是旁白） | 10 / 8–16 / 6 | 12 / 9 | −4…2 | −11…−3 | −20…−10 | −10…−3 | 人声 −2 | hero 下音乐让 2.5 dB |
| `cartoon` | 07 手绘、角色短片 | 同 promo | 10 / 8–16 / 6 | 12 / 9 | −2…4 | −6…0 | −16…−8 | −6…0 | 人声 −2 | 音效峰值 ≤ 锚点 +9 dB；hero 让 2 dB |
| `mv` | 04 MV | 音乐 | 6 / 4–12 / 3 | 12 / 9 | −8…−2 | −16…−8 | −26…−14 | −12…−5 | 人声 −4 | 不让、不加宽 |
| `swatch` | 风格样片（`render.sh`） | 音乐 | –（没有旁白） | – | −5…1 | −11…−4 | −19…−11 | −10…−3 | – | 房间 0.25 s；hero 让 2 dB |

VMR 这一列有三个数：
- 目标：混音器把每句压到这里；
- 正常范围：`qa mix` 在范围外报 `LOW`、`HIGH` 警告；
- 硬下限：低于它是硬失败。

所有 profile 一样的：
- 每个事件最多动 ±9 dB；
- 音乐的整体增益由各句下面的音乐定，限制在 −24…+6 dB 以内，被限住时日志会说明；
- `lufs=-14`，`tp=-1.65`（见下面的 AAC 编码）；
- 起始平衡是 `music_db=-6 sfx_db=0 voice_db=0`，swatch 用 `render.sh` 原来的 0 / −3。

起始平衡要写成片子原来用的值：音效（以及没有旁白时的音乐）从它出发往目标走一半。有旁白时，音乐的位置由 VMR 决定，和 `music_db` 无关。

其他参数：
- `sfx=`（一整条摆好的音效轨）只能当一层 detail，不分级，所以有 events.json 时用 `events=`；
- `roles=`、`keep=` 见下文；
- `stems=DIR` 按最终增益写出各总线和 `meta.json`，`bin/vh qa` 的 `--stems` 读它；
- 不写 `profile`（或写 `profile=none`）就是原来的 ffmpeg 链（`duck=voice` 侧链压缩，响度按 loudnorm 定），输出和以前逐字节相同。

**报错退出时什么都不写。** 事件写错（比如给提示音写了 `pitch`）、缺文件、参数不对，`bin/vh mix` 都报错退出，`mix.wav`、stems 和 `meta.json` 留着上一次的。`bin/vh qa` 照样能在旧混音上跑完，所以它先看混音是不是新的：事件表、节拍表、`--events`、`--voice`、`--timeline`、`--words` 或 `meta.json` 记下的输入比混音新 2 s 以上，有音效事件落在混音结尾之后，或者旁白比混音长，就在报告开头写出 `STALE?` 和原因，最后一行也带上。`qa mix` 只查第一项，拿这些输入和 `meta.json` 比。这只是警告，不算失败：刚 checkout 或拷过来的文件也会显得比混音新。看到它就重跑 `bin/vh mix`，确认退出码是 0，再跑 qa。

**什么时候写 `role`**：
- 类先看事件的 `"role"`；没写时，`"layer": "sonification"` 是 signal；再没有就按名字里的整词判断（复数也算）：
  - impact、boom、stomp、slam、ding、success、error、bell、snap… 是 hero；
  - click、tick、pop、toggle、whoosh、whip、paper、shimmer、step、typing… 是 detail；事件名就是 `air` 或 `tape`（不带路径和扩展名）时是内置转场，也是 detail，文件 `sfx/air.wav`、`TAPE.wav` 仍按词判断，是 ambience；`tape_stop`、`tape_rewind` 是 detail，`tape_hiss` 是 ambience；
  - gust、wind、rain、hum、hiss、creak、room、drone… 是 ambience；
  - 都不是就归 detail。`clock_tick`、`ticks` 算 tick；`airhorn`、`dropdown`、`human` 不会被当成 air、drop、hum。
- 名字和它在这支片子里的作用不一致时就写 role：
  - 01 的风（`gust_1`、`gust_2`）是这个包袱的动作本身，是 detail，不是 ambience；
  - 00 的最后一个 thock（`thock_lo`）是整个 hook 落地的那一下，是 hero；
  - 落在关键帧上的一记拨弦（ink-wash 墨滴落下时的古筝）也是 hero。
- 不想改 events.json 时，用 `roles=roles.json`：`{"<事件序号>": "hero", "<sfx 名>": "detail"}`，它覆盖事件自己的 role。对不上任何事件的键会被列出来。样片在 swatch.js 的 `FOLEY` 里写 `role`，`foley.mjs` 会带进 events.json。
- 报告 `[5]` 的 why 列写着每个事件的类是怎么来的，先看它。

**怎么读混音报告**（`bin/vh qa mix <stems>`，或 `bin/vh qa <mix.wav> … --stems` 输出的最后一段）：
- `[1] loudness`：各总线的响度和占总能量的比例。
- `[2] speech`：逐句列出人声、音乐、bed（音乐 + 音效）的响度，以及：
  - VMR；
  - VMRp10：这句里 400 ms 窗口 VMR 的第 10 百分位，也就是句中最差的时刻；
  - VBR：人声减整个底；
  - 1–4 kHz SNR。

  flag 的含义：
  - `LOW`、`HIGH`：出了正常范围；
  - `FAIL`：低于硬下限；
  - `NO VOICE`：人声 stem 里那句没有声音，timeline 和配音文件对不上，这句不参加检查；
  - `no music`：这句下面没有音乐，没有 VMR 可判。
- `[3] masking`：每个词在 1–4 kHz 的 SNR，列出最危险的 8 个。三个数分别是对整个底、对音乐、对音效，看是谁盖住的。词级时间来自 `--words`，或 timeline 里 `bin/vh tts … --align gemini` 写的 words；都没有时按 0.4 s 一段算，只给警告（段会跨过停顿，读数偏悲观）。
- `[4] gaps`：每个停顿里音乐的响度，相对锚点，也相对前后两句下的音乐。
  - 短停顿里抬高很多，听起来就是"呼吸"；配乐在那里正好有段落或 hit 时，报告会注明"可能是设计的起势"。
  - 2 s 以上只有音乐的一段，比旁白响 3 LU 以上时也会警告：音乐只有一个整体增益，如果各句下面的音乐比这里轻很多，这段就会显得很冲。
- `[5] SFX`：每个事件的类、它自己的 fast 响度和真峰值，以及三个相对值：
  - 相对锚点：类的范围判的就是这一列；
  - 相对当时的底；
  - 说话时相对人声。

  flag 的含义：
  - `HIGH`、`LOW`：出了类的范围；
  - `OVER-VOICE`：说话时 hero 高于表里"说话时 hero 最高"那一列，硬失败；
  - `MASKS-VOICE`：它的 1–4 kHz 离人声不到 6 dB；
  - `BURIED`：比底低 14 dB 以上（mv 是 16 dB），听不见。

  末尾是各类的中位数，和顺序检查：hero、signal 都应该 ≥ detail ≥ ambience，hero 和 signal 之间不排。
- `[6] depth`：各总线的宽度、分频段左右相关、盲估的混响时间、频谱重心、干湿比。人声应当最干、居中，音效其次，音乐最宽最湿。
- `[7] limiter`：母带限幅器压在哪里、压了多少。超过 2 dB，说明进限幅器之前的峰值太高。
- **硬失败**（退出码 1）：
  - 有一句低于硬下限；
  - 说话时 hero 超过它的上限；
  - 有词级时间时，低于 presence 地板的词超过 profile 允许的比例；
  - 某一类的中位数离范围超过 3 LU。低频命中低于范围时按范围下限算，因为混音器本来就不抬它，这种情况只给警告；
  - timeline 里有句子，但人声 stem 在所有句子下面都没声音；
  - 在 `bin/vh qa … --stems` 里，一个 cue 只以"弱"通过对位检查，报告又说它 `BURIED`：它对上了，但听不见。
- **怎么改**：
  - 一句 `LOW`：多半是那句本身太轻（拉平最多 3 dB），或配乐在那里有个很响的峰（看 `[4]`）。重录那句，或在 score 里把那一段收一收；
  - `OVER-VOICE`：把 hero 挪出句子，或者它本来就不是主角，写成 detail；
  - 某类中位数偏：先看 why 列；分类对的话调 `gain_db`（混音器只走一半，设计的相对大小要先对）；
  - `BURIED`：提高 `gain_db`，或换一个 1–4 kHz 更多的声音。样片里被判“弱 + BURIED”的 tick，在旧配乐下提高 3 dB 就过了；换成现在更密的配乐以后要 3–12 dB，原因写在各样片 `FOLEY` 的注释里（blueprint、crt-terminal、neon-step-print）；
  - 低频 hero 在手机上弱（报告说 "% of its energy under 150 Hz"）：加一层 1–4 kHz 的起音，不要加增益。

**AAC 编码和 cue check**：
- **真峰值**：
  - AAC 编码会抬高真峰值，抬多少看内容和码率。用混音器的表（4 倍过采样）量，混音都是 `tp=-1.65`：
    - showcase 的三支片子（01–03）用 profile 混：`bin/vh mux` 的 192k 下是 −0.12…+0.08 dB，成片都在 −1.5 以下；换成 128k 是 −0.01…+0.16 dB。
    - 样片用 128k：2026-10-01 的 28 个样片第一次编码在 −1.9…+1.4 dB 之间，13 个变高（editorial-data 的钢琴 +1.35，dunhuang-mural +1.04）；换配乐以前是 +0.16…+0.86 dB。重混后限幅更重时还会更高：editorial-data 第二次重混 +2.4 dB。这个范围不是安全余量，每次都要量编码后的文件。
    - 限幅器压得很多的合成测试更高：一段没有旁白、限幅 2.6 dB 的混音在 192k 下 +0.80 dB，一条只有合成音效的总线 +1.2…+1.5 dB。

    profile 默认的 `tp=-1.65` 只够第一种情况。
  - `render.sh` 会测编码后的 mp4：高于 −1.5 dBTP 时，从混音实际的真峰值（和原上限取较低者）再降低超出的量加 0.1 dB，重混、重编码；最多 3 次，还超就报错退出。现在的 28 个样片里有 3 个需要：cutout-jazz 一次，dunhuang-mural 和 editorial-data 各两次。
  - 其他成片自己测：`ffmpeg -i final.mp4 -af ebur128=peak=true -f null -`，超了就用更低的 `tp=` 重混。
  - 真峰值按 BS.1770 的 4 倍过采样算；16 倍过采样在瞬态上最多再高 0.16 dB。
- **门禁是 WAV**：`bin/vh qa mix.wav …`。
  - 成片 mp4 再跑一次，扫描照常判定。cue check 的容差加 12 ms，单个 cue 的问题只给警告：混音实验的 16 个 mp4 里有 284 个 cue，AAC 让 onset 最多偏 5.4 ms，另有 3 个临界的 onset 一边检测到、一边没有。
  - 整个编码系统性地偏了才判失败，这是封装错位（有 8 个以上 cue，超过 20% 对不上，或者中位误差超过 15 ms）：音轨晚 20 ms 或 60 ms 都会失败。检测器自己的滞后是 +3…+8 ms。
  - 混音报告读的是 stems，不在 mp4 上重跑。
- **margin**：每个 cue 都打印 margin，即 onset 强度超出检测门槛多少。低于 0.02 标成 `OK~`，是警告：电平稍微一变，它就可能检测不到。
- **近乎纯音的音效**（tick、ding、toggle，频谱平坦度低于 0.01）在配乐下很难触发 onset 检测。onset 没找到或者临界时，用它自己的声音和混音做互相关（250 Hz–9 kHz，参考 motioner 的 sync_check）：
  - 在 1 帧以内找到、匹配度 ≥ 0.3，就算 OK；
  - 正好落在计划的采样上（±1 ms）、匹配度只有 0.15–0.3，算对齐但很弱，给 `OK~` 警告；
  - 峰值落在搜索窗边缘 4 ms 以内，或者 ±250 ms 内的更远处有明显更好的匹配（高 0.05 以上），都不算：长音挪走以后，窗口里最靠近它的那一边照样相关得很好。拿 28 个样片做了 96 个测试混音，每个把一个纯音挪开 60–100 ms：互相关原来确认了其中 19 个，现在一个也不确认（10 个变成 OFF，9 个只剩临界的 onset，给 `OK~` 警告）；位置正确的混音上，68 个确认一个没丢。

  互相关只能确认一个 cue，不会判错一个 cue。
- **第 0 帧的 cue**：前面先垫一帧静音再检测，否则 onset 没有起点。
- **同步点被压没了**：profile 把某段音效压低以后，一个同步点检测不到了，就用 `keep=<这个 cue 的时间>` 重混，那一段保持设计电平；或者提高那个事件的 `gain_db`、改它的 role。
- **抽吸**：给了 `--stems` 时，抽吸检查不算音乐 stem 里本来就有、而且一样深的凹陷（配乐自己的动态），只报混音造成的。

**局限**（测出来了，还没解决）：
- profile 只把每个事件往目标走一半：它压缩分布、保留设计的先后，不会替你判断哪个音效重要。`gain_db` 设计得离谱，结果还是会偏。
- 低频命中不能靠增益解决，要加 1–4 kHz 的一层；名字提示会分错，看 `[5]` 的 why 列。
- cue check 只看那个时刻有没有 onset，不知道是谁的：音效挪开以后，计划时刻上配乐自己的 onset，或者这个音效的第二个音（toggle 的第二下、success 的琶音），照样让它通过。上面 96 个挪开 60–100 ms 的测试里，有 39 个这样干净地通过，都是 toggle、ding、success。
- 事件电平（fast、m400）的窗口截在事件两端，这是混音实验定下的算法，类的范围就是按它标定的。所以短的、或者最响的地方在开头 50 ms 以内的声音，读数偏高：内置的 tick +7.0、click +5.2、pop +2.9、toggle +2.8、error +1.9、shutter +1.5 LU。在 profile 内部它是一致的，但不能拿去和别的表比。
- TTS 的峰均比有 13–16 dB。旁白为主的片子，人声的峰值控制最多压 2.5 dB，母带限幅器最多 1 dB。
- 抽吸检查的门槛（4 dB、60 ms）偏敏感，会把配乐自己的凹陷报出来，给 `--stems` 可以排除。
- 响度：profile 在 BS.1770 上定 −14（ebur128 读 −14.0），loudnorm 在混音实验的 8 段混音上读 −14.2 到 −13.7。不写 profile 的默认链仍按 loudnorm 定 −14。
- 确定性：同一台机器上两次输出逐字节相同（房间的 IR 用固定种子，信号路径里没有 ffmpeg 滤镜）；跨平台时 FFT 的最低几位没有验证。
- 速度和内存（M3 Max）：25 s 的片子 3–5 s（含解码），3 分钟约 24 s；内存约每分钟片长 1 GB。
- 配乐自己的空间（每个 profile 该用多大的混响、旁白下旋律往两边摆）还没有接进 `bin/vh music`，是下一步。

## 已知局限（测出来了，还没修）

下面这些已经测出来了，但还没有修。用工具的结果时，要把它们考虑进去：
- **`qa` 的抽吸检查会漏掉又长又浅的凹陷**：约 300 ms、−8 dB 的凹陷占了 600 ms 中位数窗口的一半，查不出来，只能靠掉音检查（−12 dB）兜底。
- **`qa` 的 cue check 按全片最响的 onset 归一化**：别处一个特别大的 onset，会让很弱的 cue 被判成 OFF。每个 cue 现在都打印 margin（超出门槛多少），临界的标成 `OK~`，近乎纯音的音效还会用自己的声音确认一次（见上文"混音"的 cue check），但归一化本身没有变。
- **没有起音的声音，cue check 测不到**：直线划过、刮刻、渐强这类连续的纹理音效，几乎必报 OFF。要对点的，在开头叠一下短促的"接触声"（笔尖落纸、刻刀入木），对点的是这一下，纹理本身不登记成 cue。段落 `stop` 也一样：`bin/vh music` 会自动登记一个 `stop:段落名` 的 hit，qa 照样查它，但 stop 只让声部停下，没有新的起音可测。要让"停"对点，就在那一刻放一个有起音的音；只是想让某个声部退出，用 `dyn` 推子收，不登记成 cue。
- **`qa` 的 click 只是警告，不算失败**：机器分不清设计好的尖锐起音和真故障，只豁免节拍表和事件表里的时间点。网格之外的设计性起音也会被列出来，比如十六分音符 ostinato 的音头、typing 连击、glitch 音效内部的门控。工具按倍数列出最严重的 10 处，要人耳逐个复听。门槛是局部电平的 15 倍：埋入测试里，6 个 0.37 幅度的 click 全部抓到，包括 riser 噪声下面那 2 个（17 倍、20 倍）；更深地埋在噪声里的 click 仍然可能漏掉。
- **`beats` 的 BPM 在切分节奏上可能报成一半**：两段测试 loop 分别报成了 49.7（实际 100）和 63.0（实际 127）。
- **几个内置音效的落点不在能量峰上**：plain 的 whoosh（variant 0）能量峰在落点后约 34 ms（约 1 帧），塑形过或换了 variant 的 whoosh、whip、swoosh_tonal、air、paper 落在自己最响的 50 ms 的中间；swish_rev、tape 和 riser 在落点上结束（最后一个采样），能量峰在前面（swish_rev 约 100–280 ms，tape 约 0.5 s）；shimmer 从落点开始往上叠，最响处在落点后约 50–400 ms。

## 手动的响度和合成命令

`bin/vh mix` 和 `bin/vh mux` 已经内置下面这些；手动做时：

```bash
# 本地中文 TTS（安装：uv tool install mlx-audio 或在项目 venv 里 uv add mlx-audio；模型名以 mlx-audio README 为准）
# 词级时间戳：whisper.cpp（brew install whisper-cpp）或 FunASR（uv add funasr）
# 响度标准化到 -14 LUFS（短视频平台常用），只加一个整体增益，bin/vh mix 已经内置；手动做时：
ffmpeg -i mix.wav -af loudnorm=I=-14:TP=-1.5:LRA=20:print_format=json -f null -   # 第 1 遍：记下 input_i 和 input_tp
ffmpeg -i mix.wav -af volume=<G>dB mix_norm.wav                                   # 第 2 遍：G = −14 − input_i；input_tp + G ≤ −1.5 时到此为止
ffmpeg -i mix.wav -af "volume=<G>dB,aresample=192000,alimiter=limit=0.84:level=false:latency=true,aresample=48000" mix_norm.wav   # 否则加真峰值限幅（0.84 ≈ −1.5 dBFS）
# 再用第 1 遍的命令测 mix_norm.wav：限幅会吃掉一点响度（把 G 补回去），回到 48 kHz 会让真峰值高出约 0.2 dB（把 limit 再降一点）
# 视频与音轨合成：先出无声成片，再用 bin/vh mux 把音轨补齐或截到视频的精确长度（-shortest 按 AAC 帧截断，会吃掉最后 2 帧）
ffmpeg -framerate 30 -i out/frames/f%05d.jpg -c:v libx264 -crf 17 -pix_fmt yuv420p out/final.mp4
bin/vh mux out/final.mp4 audio/mix.wav out/final-av.mp4
```

**给旁白垫静音，别用 `anullsrc` 加 `concat` 滤镜。** `-f lavfi -i anullsrc` 这一路输入解码出来是 8 bit 的 `pcm_u8`，`concat` 又要把每一路转成同一种格式：静音排在第一路、长度用 `anullsrc=…:d=` 或滤镜里的 `atrim` 定时，旁白就被转成 u8 再拼，整条人声只剩 1/128 一级的精度（ffmpeg 8.0.1 实测，16 bit、24 bit 和浮点的源都一样）。输出写成 `pcm_s24le` 救不回来，在 `concat` 后面加 `aformat` 也不行。静音排在后面、或者用输入的 `-t` 定长度时这次没中，但格式怎么协商由 ffmpeg 决定，别靠它。现象是 `bin/vh qa` 报出大量 click（一支 457 s 的旁白片报了 2000 多处），停顿里的样本在 0 和 −1/128 之间跳；查法是取一段安静但不全是零的样本（句间的底噪、尾音），乘以 128 全是整数就是中了。旁白要晚一点进来，最省事的是合成时加 `--lead`（`playbook/04-audio.md` 的"配音"）；合成以后再垫，用 `adelay` 和 `apad`，或者在 numpy、soundfile 里直接拼数组：

```bash
ffmpeg -i vo.wav -af "adelay=600:all=1,apad=whole_dur=457" -c:a pcm_s24le vo_film.wav   # 前面垫 0.6 s，后面补到 457 s，人声逐采样不变
```

非要用 `concat`，就在它的每一路输入上都加 `aformat=sample_fmts=s32`。`bin/vh tts` 的句间静音是先写成 16 bit 的 WAV 文件、再用 concat demuxer 拼的，不受影响（实测逐采样一致）。

mlx-audio 和 FunASR 的具体调用方式以各自 README 为准，第一次用时读一遍再写脚本，并把可用的命令记进项目的 `LESSONS.md`。
