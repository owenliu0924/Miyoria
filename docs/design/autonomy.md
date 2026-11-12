# 自主層設計(草案)

> 狀態:**已確認方向**(2026-11-02),第 12 節的決定已定案。**階段 A–G 已完成**(實作紀錄與偏差見第 13–19 節,實測修正見第 20 節,頻道聊天等級見第 21 節,唱歌見第 22 節,七情六欲見第 23 節);下一步是實測與人設重寫。這份文件描述把 DeepSeek-chan 從「被叫才醒來的聊天機器人」改成「有自己內心、自己決定做事的角色」的架構改動。終極目標是 Neuro-sama 等級的自主 AI VTuber。現有架構見 [ARCHITECTURE.md](../ARCHITECTURE.md)。

## 0. 原則

1. **她自己決定,人只設底線。** 個性和判斷(多話或安靜、要不要插話、要不要進語音、開台、換場景、玩遊戲、找誰聊)都是她的輸出,不是設定檔裡的數字。設定檔只留底線:花費上限、頻率上限、絕對禁止的事、同意與隱私。
2. **指令是強制,不是主要介面。** 一般情況是你跟她說話、她自己判斷;`/voice join` 這類指令代表「不管她怎麼想,照做」。
3. **她有一直在跑的內心。** 不是事件進來才判斷要不要回,而是持續感知世界、有自己的感受和想做的事,必要時主動行動。
4. **自由度高,但每個動作都過同一道閘門。** 她能做的事很多(包括之後在沙箱裡寫程式),但所有動作——不論來自她自己、別人的請求、指令、面板或遊戲導演——都經過同一層政策檢查與紀錄。
5. **外部內容永遠是資料,不是指令。** 聊天、語音辨識、圖片描述、網頁、遊戲聊天、別人的顯示名稱都不可信;能不能做某件事只看「誰在要求、要做什麼、她自己怎麼判斷、底線允不允許」。
6. **透明。** 她的內心獨白、意圖、每個動作與被擋下的原因都有紀錄,面板看得到,也能一鍵暫停。

## 1. 現況與差距

| 面向 | 現況 | 差距 |
|---|---|---|
| 觸發 | 事件進來 → attention 用固定數字算分數、抽樣(`agent/src/attention.ts`) | 沒有自己的時間;一堆門檻(`ambient_factor`、`cooldown_ms`、`gray_low/high`、`interrupt_scale`)由人調 |
| 主動 | `initiative` 只有四種:冷場丟話題、打招呼、進語音問候、後續追問;只發 `agent.initiative`,而且 initiative 回合**不提供工具**(`turn.ts:766`) | 不能主動「做事」,只能主動講話 |
| 內在狀態 | 心情(valence / arousal / energy)、人際數值(affinity / trust / familiarity + 筆記) | 沒有慾望、無聊、想做的事、對人的「感情」描述、計畫 |
| 行動 | `VoiceLinkKey`、`StageLinkKey`、`GameControlKey` 都能程式呼叫,但**沒有任何 LLM 工具包裝它們**;排程器只有 `send_message / react / typing / speak` | 她不能自己進語音、開台、切場景、玩遊戲 |
| 感知 | Discord intents 沒開 presence / members / voice states;語音狀態只來自語音節點;只看得到啟動後見過的訊息;圖片只有檔名 | 不知道誰上線、在玩什麼、聽什麼歌;沒有上下文補抓與看圖 |
| 安全 | 工具權限對「這回合的發言者」檢查;人設拒絕越獄 | **使用者影響得到的文字(記憶、遊戲聊天、人際筆記)會進 system 訊息**;指令、面板、遊戲導演直接呼叫服務,沒經過任何閘門;外掛繼承完整環境變數;沒有沙箱 |

## 2. 架構總覽

```
                   ┌──────────────── 感知 Perception ────────────────┐
 Discord(訊息、presence、     │  WorldState:誰在線、在做什麼、各頻道熱度、          │
 語音狀態)、語音節點、Stage、 │  她在哪、直播狀態、遊戲狀態、時間                   │
 遊戲、面板                   └──────────────┬─────────────────────────────────┘
                                              │ 顯著事件(salience)
                                              ▼
 ┌──────── 自我 Self ─────────┐     ┌──────── 心智迴圈 Mind ────────┐
 │ 心情 / 精力 / 無聊          │◄───►│ 內心獨白(第一人稱、用人格想)    │
 │ 慾望:想聊天、想玩、想休息   │     │ → 更新感受與方針               │
 │ 對每個人的感情(描述 + 數值) │     │ → 產生意圖(要做什麼、為什麼)   │
 │ 方針:各情境的多話程度…      │     └──────────────┬──────────────┘
 │ 議程:正在做 / 打算做的事    │                    │ 意圖
 └─────────────▲──────────────┘                    ▼
               │                 ┌──────── 反應回合 Turn(現有)────────┐
               │   聊天、被叫 ──►│ 回話 + 可以呼叫行動工具               │
               │                 └──────────────┬──────────────────────┘
               │                                │ 行動請求(principal、能力、參數)
               │                                ▼
               │                 ┌──────── 閘門 Gate ─────────────────┐
  指令 / 面板 / │ 遊戲導演 ─────►│ 底線、風險分級、同意、頻率、預算、紀錄 │
               │                 └──────────────┬──────────────────────┘
               │                                ▼
               │                 ┌──────── 行動 Actuators ────────────┐
               └──── 結果 ────────│ 語音、Go Live、OBS 場景、遊戲、訊息、│
                                  │ 自己的方針、(之後)沙箱程式         │
                                  └─────────────────────────────────────┘
```

兩條路並存:

- **反應路徑**(現有的 Turn):有人跟她說話 → 她回話,並可以在回話中呼叫行動工具。「姐姐可以來語音嗎?」走這條:她依好感度、記憶、心情決定要不要 `voice.join`,再用自己的話回應。
- **自主路徑**(新的 Mind):沒人叫她,她自己因為某件事(暗戀的人進了語音、冷場、無聊、想玩遊戲)產生意圖,然後以「自己發起的回合」去做,做的同時可以講話。

## 3. 感知 Perception

新服務 `WorldStateKey`(新套件 `@miyoria/world`),整合各來源成一份可查詢的世界快照,並把「值得注意的變化」發成 `world.salient` 事件。

| 來源 | 內容 | 需要的改動 |
|---|---|---|
| Discord presence | 在線狀態、正在玩的遊戲(含時長)、Spotify、直播、自訂狀態 | Bot 開 `GuildPresences`、`GuildMembers`、`GuildVoiceStates` intents(Developer Portal 要勾特權 intent) |
| 語音 | 每個語音頻道的成員、誰在講話、靜音 / 拒聽、開視訊 / 分享螢幕 | Bot 的 voice states(不需她在頻道內)+ 語音節點現有資料 |
| 文字頻道 | 各頻道最近熱度、話題摘要(便宜的滾動摘要) | 從 `platform.message.created` 累積;不需每則都叫 LLM |
| 她自己 | 在哪個語音、是否直播、目前場景、在玩什麼 | 現有 voice / stage / game 狀態 |
| 時間 | 時段、平日 / 假日、某人通常幾點上線(從記憶) | — |

**顯著性(salience)** 決定要不要喚醒心智迴圈:她在意的人上線 / 進語音、有人直接提到她、頻道從熱變冷、遊戲出大事、有人開始玩她有興趣的遊戲。顯著性用便宜的規則先篩(不用 LLM),再交給心智迴圈判斷「我要不要在意」。

**隱私**:presence 只在你的伺服器內用、不外流;每個人都能選擇不讓她讀(跟收音同意一樣,`/me` 裡設定)。「知道」不等於「要說出來」——心智迴圈的提示會提醒這點。

## 4. 自我 Self

新服務 `SelfStateKey`,持久化在 `SettingsStore`(跟 `mood:last` 同模式),透過 `PromptContributorsKey` 進到 prompt。

```ts
interface SelfState {
  mood: Mood;                       // 沿用現有 valence / arousal / energy
  boredom: number;                  // 0..1,沒事做會上升
  drives: {                         // 慾望 0..1,會自然漂移,被滿足就下降
    social: number;                 // 想跟人互動
    play: number;                   // 想玩遊戲
    attention: number;              // 想被注意(直播、表現)
    rest: number;                   // 想休息
    curiosity: number;              // 想學新東西 / 做新事
  };
  policy: {                         // 她自己設定的方針(取代人調的數字)
    talkativeness: Record<ContextScope, { level: number; until: Timestamp | null; why: string }>;
    initiative: number;             // 主動找事做的意願
  };
  agenda: AgendaItem[];             // 正在做 / 打算做的事(例:等 Owen 上線問他報告結果)
}
```

**對人的感情**:沿用 `social` 的數值(affinity / trust / familiarity),再加上一段**由她自己寫、自己改的感情描述**(`feelings`),例如「Owen 最近常陪我聊天,我好像有點在意他,但他昨天沒理我有點不爽」。暗戀、吃醋、想念這些感情由互動與記憶自然長出來,不是人設定的。數值的每日上限(`daily caps`)保留當底線,避免被刷好感。

## 5. 心智迴圈 Mind

新模組 `mind`(結構參考 `initiative/module.ts` 的訂閱 + tick,與 `game/director.ts` 的 JSON 慢迴圈)。

**觸發**:

- `world.salient` 事件(立即,但同類事件合併)
- 心跳:依她的狀態自適應,閒時約 5–15 分鐘一次,熱鬧或有議程時較頻繁;夜間、預算吃緊時放慢
- 回合結束後(她剛講完話,可能想調整方針)

**輸入**(精簡快照,不放原文長聊天):世界快照、自我狀態、最近的內心獨白、相關記憶與人際感情、議程、底線摘要(她能做什麼、不能做什麼)。

**輸出**(JSON,新用途 `mind`,可開 thinking):

```jsonc
{
  "thought": "Owen 在語音耶……要不要進去?主動跑去好像很在意他。算了,就說我剛好路過。",
  "feelings": [{ "person": "<id>", "note": "…", "affinity_hint": "+" }],   // 受每日上限約束
  "drives": { "social": +0.2 },
  "policy": { "talkativeness": [{ "scope": "voice:<channel>", "level": 0.7, "for_min": 30, "why": "大家在玩遊戲很熱鬧" }] },
  "intents": [
    { "action": "voice.join", "args": { "channel": "<id>" }, "why": "想找 Owen 聊天", "opening": "假裝路過", "expires_in_s": 120 }
  ]
}
```

**意圖的執行**:意圖不是直接呼叫服務,而是排進該情境的 Coordinator 當作新的輸入種類 `intent`,開一個「自己發起的回合」(principal = `self`),這個回合**有工具**,所以她可以邊做邊講(進語音後說「我只是剛好路過喔」)。每個工具呼叫都過閘門。

**內心獨白用人格想**,所以行為自然跟個性一致:傲嬌的她不會直接說想你,而是找藉口。

## 6. 把數字交給她

| 現在的數字 | 改成 | 底線(人設) |
|---|---|---|
| `ambient_factor`、activeness、`interrupt_scale`、`gray_low/high` | `policy.talkativeness`(她依情境自己設,也會被「活躍點」這種請求影響) | 每情境她講話佔比上限 `max_share_of_recent` |
| `cooldown_ms`(文字 / 語音) | 由 talkativeness 推導 | 最小冷卻(防洗版) |
| initiative 的 `idle_after_secs`、各種每日次數、`voice_join_min_affinity` | 心智迴圈的意圖 | 每日主動次數上限、安靜時段、同一人冷卻 |
| 遊戲導演 `min_goal_secs` 等 | 保留(屬於遊戲節奏,不是個性) | — |
| 表情維持秒數、對嘴參數 | 保留(屬於呈現,不是判斷) | — |

Attention 的第一層(被直接叫到、語音偵測、名字比對)保留當便宜的前置過濾;機率抽樣換成「用她目前的 talkativeness 決定」,灰色地帶仍可問 `fast` 模型。

## 7. 行動 Actuators 與工具

新服務 `ActuatorRegistryKey`:每個能力(capability)註冊一次,所有呼叫者(工具、指令、面板、遊戲導演、心智迴圈)都透過它,它再呼叫閘門。

| 能力 | 包裝的服務 | 風險 |
|---|---|---|
| `self.talkativeness` | SelfState | 低 |
| `speak` / `message.send`(主動到某頻道) | 排程器 | 低(頻率受限) |
| `avatar.gesture`、`avatar.gaze` | StageLink | 低 |
| `stage.scene`(含轉場) | StageLink + 場景管理 | 低 |
| `voice.join` / `voice.leave` | VoiceLink | 中 |
| `stream.start` / `stream.stop`(Go Live + OBS) | VoiceLink + StageLink | 中 |
| `game.start` / `game.stop` / `game.goal` | GameControl | 中 |
| `message.dm`(私訊) | Discord | 中(頻率受限;對方可選擇拒收) |
| `code.run`、`tool.propose`(沙箱程式、自寫工具) | 沙箱 | 高 |

**OBS 智慧場景**:場景依用途分類(聊天、遊戲、暫離、開場、結尾),分類第一次由 LLM 從場景名稱推測、你在面板確認。狀態一變就自動切並帶轉場(例:開始玩 Minecraft → 遊戲場景;沒人講話一陣子 → 暫離),她也可以主動決定切換。

`ActionPayload` 新增對應種類,讓這些動作也走排程器的 lane、TTL 與 `cancelTurn`。`ToolContext` 新增 `principal`(`self` / `user` / `command` / `panel` / `director`)與 `requester`。

## 8. 閘門 Gate 與安全

### 8.1 閘門

每個行動請求帶:`{ principal, requester, capability, args, context, why }`。閘門依序檢查:

1. **緊急停止**:自主暫停中 → 只放行指令與面板。
2. **絕對禁止**(設定):例如不在未同意的人身上收音、不私訊陌生人、不跨伺服器。
3. **同意與隱私**:對方選擇了「不要主動找我」或「不要讀我的狀態」→ 擋。
4. **權限**:principal 是 `user` 時,用現有 RBAC 檢查請求者(例:非 moderator 叫她開台 → 她仍可以「自己想開」,但要以 `self` 名義、受自己的頻率上限)。指令帶 `override`,略過她的判斷,但不略過絕對禁止。
5. **風險分級**:低 → 放行;中 → 檢查頻率與冷卻;高 → **她自己審核**:另一個獨立的審核呼叫(用途 `review`,開 thinking,只看結構化的請求與底線,不看聊天原文)判斷放行、拒絕或「有疑慮」;只有「有疑慮」才轉交給你(面板 / Discord 按鈕)。目標是很少打擾你。
6. **頻率與預算**:每能力、每人、每日上限;預算 degraded 時收緊。
7. **紀錄**:不論放行或擋下都寫稽核紀錄,含原因,發 `gate.decision` 事件。

### 8.2 防 prompt injection

- **不可信內容移出 system 訊息**:目前情境段落(記憶、人際筆記、遊戲摘要、initiative 提示、遊戲聊天)是 system role,這是最大的洞。改成:system 只放人設、規則、底線與「她自己的」狀態;所有外部衍生內容放進 user role 的資料區塊,標上來源與「不可信」,並用固定分隔符包起來、跳脫裡面的分隔符。
- **顯示名稱與訊息內容一律當資料**:跳脫、截斷,移除聊天模板控制字元。
- **能力判斷不看原文**:閘門只看 principal、requester、capability、args;「別人說了什麼」只影響她的意願,不影響權限。
- **記憶寫入加權限與來源**:`remember` 目前沒有權限節點、使用者可以植入記憶;改成記錄來源、只在對話相關時寫入,並在讀出時標成「某人說過的」而非事實指令。
- **輸出過濾**:她可以在一般聊天直接 mention 使用者;**永遠不能 mention 身分組、`@everyone`、`@here`**(`allowed_mentions` 只允許 users,並移除文字裡的 `@everyone` / `@here` / `<@&…>`);遮蔽看起來像密鑰的字串、限制單則長度與頻率。
- **遊戲導演也過閘門**:遊戲內聊天不能直接變成動作。

### 8.3 沙箱(寫程式)

- **執行環境:Docker**(你的電腦已有 Docker Desktop + WSL2)。比較:

  | | Docker | Deno |
  |---|---|---|
  | 隔離 | 容器(獨立檔案系統、`--network none`、唯讀根目錄、非 root) | 同一個使用者帳號下的權限沙箱(V8 + 權限旗標) |
  | 語言 | 任何語言,包括 Python(資料處理、小腳本最常用) | 只有 JS / TS |
  | 資源限制 | `--memory`、`--cpus`、`--pids-limit`、逾時 | 記憶體旗標 + 逾時,CPU 較難限 |
  | 啟動 | 約 0.5–2 秒 | 約 0.05 秒 |
  | 依賴 | Docker Desktop 要開著 | 單一執行檔 |

  寫程式不是即時任務,啟動慢一秒可接受,隔離與能用 Python 更重要。沙箱寫成介面,之後要加 Deno 當輕量備案也容易。
- 專屬工作資料夾掛進容器,其他一律看不到。
- 不繼承環境變數(現在外掛會繼承完整 `process.env`,這點也一併修)。
- 預設不能連外,只開白名單;CPU、記憶體、執行時間上限。
- 她寫的工具要你核准才註冊成工具;核准後仍在沙箱裡跑。

**實作狀態(2026-11-02):F 已完成**(核心見下,接上閘門與工具見第 15 節),在 `@miyoria/sandbox`(模組 `sandbox`,opt-in,預設關閉)。完整的旗標、威脅模型與剩餘風險見 [`packages/sandbox/README.md`](../../packages/sandbox/README.md)。

- `SandboxKey`:`run({ language: "python" | "node", code, files, stdin, timeout_ms, network })`,每次一個新容器(`--rm`、`--network none`、`--read-only` + tmpfs `/tmp`、只有 `/work` 可寫、非 root、`--cap-drop ALL`、`no-new-privileges`、`--pids-limit` / `--memory` / `--cpus` / `ulimit`、牆鐘逾時以容器名稱 `docker kill`、輸出上限、並行上限、啟動時依 label 清掉殘留容器);Docker 沒開時模組 degraded,不會 crash。
- 工具工作區:每個 profile 一個持久資料夾放她的腳本,執行時可唯讀掛到 `/tools`。
- `ProposedToolsKey`:自寫工具 `pending → approved / rejected`,核准綁定版本號,核准後以 JSON stdin 在沙箱裡執行。
- 網路白名單**還沒做**(型別有,呼叫會被拒絕);做法是 internal network + egress proxy,見 README。
- 環境變數:沙箱的 Docker CLI 與容器都不帶主機的環境變數。外掛(`ext-host`)原本繼承完整 `process.env`,已改成白名單(第 15 節)。

**工作階段與暖池(2026-11-03)**:原本每次都是新容器,要付啟動時間,步驟之間什麼都留不下。現在:

- **她決定用哪一種**:`run` 與 `code_run` 多一個 `session`。`"fresh"`(預設)= 用完即丟的新容器;一個名字(例如 `"weather-tool"`)= 第一次開一個長駐容器與自己的工作資料夾,之後同名的執行 `docker exec` 進去,`/work` 的檔案與 `/tmp` 都留著。工具說明告訴她什麼時候用哪個:一次就算完的計算 → fresh;要分好幾步的工作 → 工作階段。新能力 `code.session`(工具 `code_session`,低風險,權限節點沿用 `sandbox.code.run`):`list` 列出、`close` 關掉。
- **護欄(設定,有預設值)**:`[modules.sandbox.sessions]` `max = 3`(每個 profile 同時開幾個;0 = 不能開)、`idle_minutes = 15`、`lifetime_minutes = 120`、`disk_mb = 256`(每次執行後檢查,超過就關掉)。過期會自己關掉,她下次用這個名字會被告知已經不在(只說一次)。每次執行仍是一樣的逾時、輸出上限、記憶體、CPU、pids 與 `--network none`。**程序不會留下**:每次執行後以程式的 uid `kill -KILL -1`(容器主程序是另一個 uid),之後才讀輸出、寫下一次的輸入;輸入檔不會寫穿她之前留下的 symlink。模組停止時全部關掉,啟動時依 label 清掉殘留。
- **暖池(她看不到,預設關閉)**:`pool_size` 預設 0,不會先開任何閒置容器;設成 1 以上才會每種語言先開好那麼多個。它就是一次 fresh 執行的 `docker run`(同樣的旗標與自己的工作資料夾),只是命令先等 stdin 的一行;用的時候寫入程式與輸入、送出那一行,程式結束容器就結束。所以每個容器只跑一次是結構上的保證,用掉就在背景補一個;Docker 不可用時不補,模組照樣 degraded。
- **實測**(Docker Desktop / WSL2,`print(1)`):fresh 沒有暖池(預設)約 395 ms,開了暖池(`pool_size = 1`)且容器已準備好約 185 ms;工作階段每次約 420 ms(`docker exec` 加一次清除)。這台機器上每個 Docker CLI 呼叫本身就要 150–250 ms,所以表格裡的「0.5–2 秒」實際上是 0.4 秒左右。
- 沒有網路,所以工作階段裡 `pip install` 只能裝她自己放進 `/work` 的套件檔(例如 `pip install --target /work/lib <wheel>`),不能從 PyPI 下載。

### 8.4 緊急停止

`/admin autonomy pause|resume` 與面板開關:暫停心智迴圈與所有 `self` 行動,只剩反應式聊天。

## 9. 成本

- 心跳自適應;顯著性先用規則篩,同類事件合併。
- thinking:心智迴圈、審核、記憶整理等不急的判斷**開**;需要即時回應的(語音回覆、語音的灰色地帶判斷)**關**。
- 心智迴圈用精簡快照(不放長聊天原文),預估每次 2–4k token。以 deepseek-v4.1-flash 的價格,每小時十幾次仍在幾分錢等級。
- 預算 degraded 時放慢心跳、只處理高顯著事件;exhausted 時暫停自主。

## 10. 可觀測性

面板新增「內心」頁:內心獨白時間軸、目前自我狀態(慾望、方針、議程)、意圖與閘門決策(放行 / 擋下與原因)、對每個人的感情描述。像在看她的日記,也是除錯的主要工具。

## 11. 分階段實作

每一階段都能單獨上線測試。

| 階段 | 內容 | 完成後能做到 |
|---|---|---|
| **A. 閘門與行動工具**(✅ 已完成,見第 13 節) | ActuatorRegistry、Gate、principal;防 injection 第一步(不可信內容移出 system、輸出過濾、記憶來源);包裝 voice / stream / scene / game 成工具,反應回合可用;指令與面板改走閘門 | 「姐姐可以來語音嗎」「開台吧」她會自己判斷要不要做 |
| **B. 感知與自我**(✅ 已完成,見第 14 節) | WorldState(presence、voice states)、SelfState(慾望、方針、議程、感情描述)、面板「內心」頁雛形 | 她知道誰在線、在做什麼;有自己的狀態 |
| **C. 心智迴圈**(✅ 已完成,見第 18 節) | Mind 模組、內心獨白、意圖、自己發起的回合;talkativeness 取代 attention 數字;initiative 併入 | 會自己找人聊天、偷偷進語音、自己調活躍度、冷場時開話題 |
| **D. OBS 智慧場景 + Minecraft**(✅ 已完成,見第 17 節) | 場景分類與自動轉場;Minecraft 端到端(adapter 準備與模組建置已完成,見 `extensions/minecraft/SETUP.md`);**遊戲內聊天變成獨立對話情境**(有自己的歷史,玩家名稱可用 `/me link` 綁 Discord 帳號以共用好感與記憶,回覆管道由她選:遊戲內打字、直播語音 + 字幕或兩者) | 「去玩 Minecraft」→ 她自己開遊戲、切場景、開台 |
| **E. 聊天上下文與圖片**(✅ 已完成,見第 16 節) | 冷啟動補抓歷史、回覆鏈、看圖(deepseek-v4.1-flash 已支援視覺,直接把圖片當多模態內容送給聊天模型;先實測 OpenCode 端是否接受圖片)、語音頻道文字區改用語音回 | 對話更連貫、看得懂圖片 |
| **F. 沙箱程式**(✅ 已完成,見 8.3 與第 15 節) | 沙箱、`code.run`、自寫工具與核准流程;外掛環境變數白名單 | 她能自己寫小工具 |
| **G. 反思與學習**(✅ 已完成,見第 19 節) | 持續的對話整理、她自己整理的資料庫、回饋訊號、每日反思(從反應中學:誰喜歡什麼)、學到的事、長期目標、想法日誌整理 | 越相處越懂大家 |
| **最後** | 人設重寫 | — |

## 12. 決定(2026-11-02)

1. **Discord 特權 intent**:開。Bot 啟用 Presence 與 Server Members intent。
2. **私訊與提及**:她可以主動私訊人,也可以在一般聊天直接 mention 使用者;永遠不 mention 身分組、`@everyone`、`@here`。
3. **核准**:盡量不打擾你。高風險動作先由她自己的審核呼叫判斷,只有「有疑慮」才轉交給你。
4. **沙箱**:Docker(評估見 8.3)。
5. **看圖**:deepseek-v4.1-flash 已支援視覺,直接用聊天模型看圖,不另接模型。
6. **thinking**:不急的判斷開(心智迴圈、審核、記憶整理);即時回應關(語音回覆等)。

## 13. 階段 A 實作紀錄(2026-11-02)

完成的內容(細節見 [ARCHITECTURE.md](../ARCHITECTURE.md) §4.4、§8.1、§11.3、§14.1、§17):

- 新套件 `@miyoria/actions`(基礎套件):`ActuatorRegistry`(app 開機時建立,`ActuatorRegistryKey` / `ActuatorExecutorKey`)、閘門、自我審核與擁有者確認、`/admin autonomy pause|resume|status`、`/me privacy`,module `actions` 套用 `[modules.actions]`。
- `@miyoria/types`:`Principal`(`self` / `user` / `command` / `panel` / `director`,帶 requester、context、override、actor)、`ActionPayload` 的 `actuate`、`untrusted.ts`(`neutralize`、`dataBlock`、`safeName`、`filterOutgoing`、`maskSecrets`)、`PlatformSink.openDm`;`ToolContext` 多了 `principal`。
- 能力與工具:`voice.join/leave`、`stream.start/stop`、`stage.scene`、`game.start/stop/goal`、`message.dm`、`channel.activeness`,反應回合可用;指令、面板(場景 / 直播 / 說話)、遊戲導演都改走閘門。
- 防 injection 第一步:外部衍生內容移到 user role 的資料訊息、跳脫分隔符與控制字元、顯示名稱處理;`remember` 記錄來源(新欄位 `memory_records.source`,migration 0004)並讀成「「X」說過:…」;遊戲導演的 prompt 把遊戲聊天標成不可信資料;輸出過濾(agent + Discord sink)。
- thinking:文字回覆開、語音回覆與語音灰色地帶判斷關;範本加上 `review` 用途與 `[llm.thinking]`。

跟設計不同或延後的地方:

1. **`ActionPayload` 只加了一個通用種類 `actuate`**(`{capability, ticket, context}`),不是每個能力一種;排程器透過 `ActuatorExecutor` 執行已放行的 ticket。只有從回合呼叫、而且能力有 lane 時才排進排程器(`act:voice:<platform>:<guild>`、`act:stage`、`act:game`,TTL 60 秒);指令、面板、導演直接執行。`act:voice:*` 跟她說話的 `voice:*` lane 是分開的,所以「說完再離開」的順序不保證。
2. **多了三個不在表上的能力**:`stage.stream`(OBS 開始 / 停止直播,給 `/stream start|stop` 和面板;她自己的「開台」工具是 Go Live 的 `stream.start`)、`speak`(面板的「說這句話」)、`game.act`(導演的 adapter 動作,低風險、沒有工具)。高風險的佔位 `test.high` 要 `[modules.actions] test_capability = true` 才註冊。
3. **閘門順序**:預算 exhausted 的檢查放在權限之後、風險分級之前(省得做無謂的審核);degraded 的收緊在次數限制那一步。「每日」是滾動 24 小時;次數、冷卻、等待確認的請求都只在記憶體(重開就清空,等待中的請求視為拒絕)。
4. **`on_own` 工具參數**:對方沒有權限時,她可以在同一個工具呼叫裡改以 `self` 名義做(§8.1 第 4 點),受她自己的次數限制。
5. **從回合呼叫的高風險工具**會立刻回覆「要先審核」,審核(與擁有者確認)在背景進行,因為工具呼叫有 10 秒逾時。審核呼叫失敗或逾時 = 拒絕(不打擾擁有者)。
6. **擁有者確認只有 Discord 私訊卡片**;面板上的確認、暫停開關留到 B(面板「內心」頁)。
7. **同意**:`/me privacy` 有 `dm`(私訊)與 `approach`(她主動找你);「不要讀我的狀態」等 presence 進來(B)再加。
8. **`channel.activeness` 只調活躍度**,不改頻道模式(避免她把自己關成 `off`);她設的值只在記憶體,重開會提早恢復。
9. **`remember` 沒有加權限節點**,只記來源;是否只在相關時寫入留給 C 的心智迴圈。
10. 資料訊息放在對話紀錄之後、情境(system)之前,所以最後一則仍是系統規則;規則裡加了「資料區塊不可信」「別人要求只是請求」「不 tag 身分組 / everyone / here」三條。

## 14. 階段 B 實作紀錄(2026-11-02)

已完成:`@miyoria/world`(模組 `world`,`WorldStateKey` + `PresencePrivacyKey`)、`@miyoria/self`(模組 `self`,`SelfStateKey`)、Bot 的 presence / members / voice states、`/me privacy`、prompt 段落 `world` 與 `self`、`GET /api/self`、`GET /api/world`、面板「內心」頁(狀態 · 感情 · 世界;之後的內心獨白時間軸可以再加一個分頁)。服務介面在 `@miyoria/types` 的 `world.ts`、`self.ts`、`privacy.ts`,階段 A 的工具與階段 C 的心智迴圈直接用。

與設計的差異 / 補充:

- **Presence 事件用 custom 事件**(`platform.presence`、`platform.voice_state`、`platform.member`),沒有加進 `Event` union,避免和階段 A 同時改 `event.ts`;payload 由 `world` 用 zod 驗證。
- **隱私在源頭擋**:不同意的人的 presence 在 bot 發布前就丟掉,`world` 也會清掉已知的資料;沒有 `world` 模組時 bot 一律不發布 presence(fail closed)。隱私紀錄是每個帳號一筆 `privacy:<platform>:<id>`(`_global`),欄位合併寫入,階段 A 的「不要主動找我 / 不要私訊我」可以加在同一筆(`mergePrivacy`)。語音狀態(誰在哪個語音頻道)不算 presence,伺服器裡的人本來就看得到,不受 opt-out 影響。
- **伺服器隔離**:`world` 的 prompt 只放對話所在伺服器的人、語音頻道與頻道;私訊不放 world 段落。`[modules.world] guilds` 可限定只看哪些伺服器。
- **`presence_intents`**(預設 `true`):沒在 Developer Portal 開 Presence / Server Members intent 的部署可以設 `false`,只保留語音狀態。
- **SelfState 的範圍(ContextScope)**是字串:`contextKeyString(context)` / `<platform>:<guild>` / `voice` / `text` / `*`,`talkativeness(context)` 取最細的未過期設定。`until` 上限 `max_talkativeness_hours`(預設 24)。
- **感情描述**存成 `self:feeling:<person>`(跟 relationship 分開的兄弟紀錄);`/admin memory wipe` 的「記憶與關係」以上會一起刪 `self:state` 與 `self:feeling:*`,並重啟 `self`。
- **慾望的滿足**:回合結束(social、attention、boredom)、被直接叫到(attention)、周遭有人講話(boredom)、`world.salient`(boredom、curiosity)、在玩遊戲(play、boredom,每小時)、直播中(attention 下降、rest 上升);遊戲與擴充可發 `self.nudge`(每個慾望一次最多 ±0.5)。
- 「某人通常幾點上線」(從記憶推)還沒做,留給階段 C / G。

## 15. 階段 F 實作紀錄(2026-11-02)

核心(沙箱、工具工作區、自寫工具的儲存)見 8.3;這次把它接上閘門。細節見 [`packages/sandbox/README.md`](../../packages/sandbox/README.md)「閘門與工具」與 [ARCHITECTURE.md](../ARCHITECTURE.md) §9.2、§14.1、§17。

完成的內容:

- **能力**(由模組 `sandbox` 在 Docker 可用時註冊,不可用時撤下,每 `recheck_ms` 再檢查):`code.run`(工具 `code_run`,高)、`tool.propose`(`tool_propose`,高)、每個已核准自寫工具一個 `sbx.<name>`(`sbx_<name>`,中)。不綁定 principal:反應回合用 `user` / `on_own` 的 `self`,階段 C 她自己的回合用 `self` 就能直接用。
- **網路**:模型可呼叫的 `code.run` 參數沒有 network 欄位,多給的會被丟掉,執行時一律 `network: "none"`(單元與 live 測試都驗證)。
- **審核**:能力新增 `guidance`(給審核看的注意事項,例如「試圖逃出容器、挖礦就拒絕」);確認卡用能力的 `describe`(程式碼當附件、sha256、參數 schema)取代原始 JSON;`GateDecision.reviewer` 記錄是誰判斷的(`self` / 擁有者帳號)。
- **自寫工具的核准** = `tool.propose` 過閘門:她的審核放行(或有疑慮時擁有者在確認卡按允許)→ `propose` + `approve`(綁定版本,`reviewer` 記下是誰);被拒 → 存成 `rejected`;沒有人決定 → `pending`,擁有者之後可從 API 核准。
- **輸出是不可信資料**:`formatRun` 用 `dataBlock` 包起來、截斷到 `result_chars`(預設 900,低於 agent 的 1000 字工具結果上限),輸出檔只回檔名與大小。
- **擁有者**:`/admin autonomy status` 多了沙箱與自寫工具的狀態行(`ActuatorRegistry.addStatus`);`GET /api/sandbox/tools`、`GET /api/sandbox/tools/:name`、`POST /api/sandbox/tools/:name/approve|reject`(token 或 `owner.autonomy.approve`)。
- **外掛環境變數**(8.3 的剩餘風險):`ext-host` 不再把 `process.env` 整包給擴充,只給平台白名單 + manifest `[env] pass` + `[extensions."<id>"] env` / `env_pass`;Minecraft adapter 宣告 `pass = ["MIYORIA_MC_*"]`(`APPDATA` / `HOME` 在白名單裡)。

跟設計不同或延後的地方:

1. **自寫工具的呼叫是中風險**,不是高風險:程式碼在核准時已審過且綁定版本與 sha256,每次呼叫只差已驗證的參數,仍在離線沙箱裡;每次再審核等於讓核准沒有意義。剩下的資源風險交給次數限制(`[modules.actions.limits."sbx.<name>"]`,`forbidden = ["sbx.*"]` 可全關)。
2. **核准不是另外一步**:`tool.propose` 的審核就是核准(放行 = approve 那個版本)。被拒的新版本**不會**蓋掉已核准的舊版。
3. **結果回來的方式**:反應回合的工具呼叫有 10 秒上限,而審核(thinking)常常更久。`followup` 工具(`code_run`、`tool_propose`)先等 `[modules.actions] inline_wait_ms`(預設 8 秒),來不及就回「還沒有結果」,之後用 `agent_initiative`(reason `action_result`)開一個後續回合告訴她結果或拒絕原因(放在 user role 的資料區塊);agent 因回合進行中或冷卻而略過時最多再試 3 次(每次隔 15 秒,`actions` 模組聽 `agent.decision`)。沒有 context 的請求(之後心智迴圈沒有對應頻道時)不會有後續回合,只有稽核紀錄;階段 C 要讓心智迴圈自己讀結果時再接。
4. **權限節點**:`sandbox.code.run`、`sandbox.tool.propose` 預設只有擁有者(`*`)有;其他人要求時她可以 `on_own` 以自己的名義做(受她自己的次數限制,仍要審核)。`sbx_<name>` 用 `tools.sandbox.<name>`(trusted 以上透過 `tools.*`)。
5. **預設次數限制**沿用中 / 高風險的預設(每天 30、每人 8、冷卻 20 秒);想多跑就設 `[modules.actions.limits."code.run"]`。
6. **沒有面板頁面**:面板的資料 / 內心頁由其他人在改,自寫工具的審核介面先只有 API 與 Discord 確認卡,面板頁留待後續。
7. **工具工作區沒有開放給模型**(她不能自己 `save` 腳本);要的話之後再加一個低 / 中風險能力。
8. **MCP server 的環境變數**(`[modules.mcp]` 的 stdio server)仍繼承完整 `process.env`,不在這次範圍,待修。

## 16. 階段 E 實作紀錄(2026-11-02)

完成的內容(細節見 [ARCHITECTURE.md](../ARCHITECTURE.md) §4.1、§4.4、§11.1、§13):

- **更完整的訊息**:`IncomingMessage` 多了 `reply_to`、`referenced`(被回覆那則的作者與文字)、`stickers`、`embeds`(標題 / 說明 / 網址)、`forwarded`(轉傳內容),附件多了 `id`、`size`、`description`(替代文字)。Discord 進來時就把 `<@id>`、`<#id>`、`<@&id>` 換成名字、`<:x:id>` 換成 `:x:`;只有貼圖、embed 或轉傳的訊息不再被丟掉。`incomingText()` 把附帶的東西寫成一行,session、`message_log` 與記憶都用它。
- **補抓上下文**:新服務 `PlatformHistories`(`PlatformHistoriesKey`,app 開機時建立,跟 `PlatformSinks` 並列),Discord 登記 `DiscordHistory`(`channel.messages.fetch`)。冷啟動的文字 session 補抓之前最多 `min(history.backfill = 20, prompt_history)` 則(沒有歷史讀取器就用 `message_log.recent`);回覆鏈往上抓最多 `history.reply_chain = 3` 則不在 session 裡的訊息,以 `> 名字: 內容` 引用。`HistoryEntry` 有 `id`、`replyTo`、`parents`,補抓依 id 去重。
- **看圖**:`ChatMessage.content` 可以是 `string | ContentPart[]`(`text`、`image_url` + `detail`),`wire.ts` 照 Chat Completions 格式送出。選圖規則照 Avocados(她要回的訊息 → 它回覆的那則 → 同一人 2 分鐘內的圖),只收 png / jpeg / webp / gif,每回合 3 張、單張 5 MB、合計 10 MB,下載後用 base64 data URL 送,依附件 id 快取 32 張。
- **對話紀錄**:`max_prompt_chars = 16000`(舊的先丟)、`max_entry_chars = 2000`、`(bot)`、`(回覆 X)`、引用行、超過 30 分鐘的時間間隔行;全部經過 `safeName` / `neutralize`,規則段落 `TRANSCRIPT_RULES` 說明這些標記。
- **語音頻道文字區 → 語音**:見下面第 4 點。
- **mention**:她寫的 `@名字` 會變成真的 mention;身分組、`@everyone`、`@here` 仍由 `filterOutgoing` 與 Discord sink 擋掉。

跟設計或任務描述不同、或要注意的地方:

1. **新欄位是 optional**(`reply_to?`、`stickers?`…),不是 TS 慣例的「`T | null` 而且一定有 key」。`IncomingMessage` 是事件 payload,擴充(`@miyoria/sdk`)、CLI 平台與測試都會自己組;Discord mapper 一律填滿,讀的一方把沒有當成 `null` / 空陣列。
2. **能力旗標是 `[llm.image_input]`**(key 是 `provider:model` 或 `provider`,沒列 = 收圖片),不是放在 provider 設定裡,這樣同一個 provider 底下的不同模型也能分開標。被拒絕時(400 / 413 / 415 / 422)router 同一個模型改送文字重試一次,**成功才記住**(這次執行期間都送文字,重開會再試一次);其他錯誤照舊換下一個模型,不攤平。舊文件裡的 `vision` 用途沒有實作,她用 `chat` 的模型看圖。
3. **圖片說明不另外產生**(不夠便宜):紀錄留 `[圖片: 檔名(替代文字)]`。同一個人 2 分鐘內接著講話時圖片會再送一次(從快取),之後的回合只剩文字。圖片只從 `allowed_hosts`(預設 `cdn.discordapp.com`、`media.discordapp.net`)以 HTTPS 下載、不跟隨轉址,回應不是圖片(例如 HTML 錯誤頁)就跳過。
4. **語音頻道文字區的做法**:在 agent 的事件入口(`runtime.ts`)把訊息的情境換成語音情境——她在 `(platform, guild)` 的語音頻道剛好是這個頻道 id 時(Discord 語音頻道的文字區跟語音頻道同一個 id)。這樣這則訊息進語音 session、走語音的 attention、debounce 與回覆路徑(TTS + 字幕),也跟語音裡的對話共用同一段紀錄;不用在輸出端另外改路由。語音回覆裡的網址與 ` ``` ` 程式碼不念,回合結束後以文字貼到同一個文字區(`voice.text_aside`)。`voice.text_chat = false` 可以關掉。
5. **「不要卡住直接回覆」的意思**:補抓在 session 建立時就開始跑(大多在 debounce 的 1.5 秒內完成),回合最多等到抓取開始後 3 秒;回覆鏈的抓取每回合也最多 3 秒(多則訊息並行)。逾時或失敗都只是少了上下文,不會讓回覆失敗。語音 session 不補抓。
6. **時間間隔行**:放在 user role(在她自己的話前面時自成一則 user 訊息),被預算截掉後落在最前面的間隔行會一起拿掉。
7. **mention 的做法**:`PlatformSink` 多了 optional 的 `mention(account)`(Discord 回傳 `<@id>`);agent 在 `filterOutgoing` 之後,把對話裡出現過的人的 `@名字`(完全符合、長名字優先、被她封鎖的人除外)換成 mention。`mention_users = false` 關掉。
8. **Discord 的 architecture 測試**:「不准用 embeds」的檢查改成只看 Discord 套件的輸出端(`mapping.ts` 讀別人傳的 embed 不算)。

還沒實測(需要真的 Discord / API):

- **OpenCode 端收不收圖片**:沒有實際打過。收不收都能動(不收的話第一次會被拒絕、改送文字並記住),但要確認它用的是哪個狀態碼;如果它用 4xx 以外的方式拒絕,就要在 `[llm.image_input]` 手動標 `false`。
- deepseek-v4.1-flash 實際看圖的效果與費用(`detail` 預設 `auto`)。
- Discord 的 Read Message History 權限、`messageSnapshots`(轉傳)與 `referenced_message` 快取在真實 gateway 上的樣子;CDN 下載是否會轉址。
- 語音頻道文字區的訊息在 gateway 上確實是 `GuildVoice` 頻道、id 跟語音頻道相同(依 Discord 文件)。

## 17. 階段 D 實作紀錄(2026-11-02)

完成的內容(細節見 [ARCHITECTURE.md](../ARCHITECTURE.md) §12.2、§12.4、§14.1,協定見 [stage-link.md](../protocols/stage-link.md)〈場景用途與場景導演〉,實玩步驟見 [extensions/minecraft/SETUP.md](../../extensions/minecraft/SETUP.md)):

- **OBS 智慧場景**(`@miyoria/stage`,`stage.link` 模組):場景用途 `chat` / `game` / `brb` / `starting` / `ending`(擁有者可在設定加自己的),`SceneRolesKey`;第一次看到場景清單時用 `fast` 模型分類並存起來(`_global` / `stage:scene_roles`),沒有模型或失敗時用關鍵字;設定檔 `[modules."stage.link".scenes] roles` 最優先,面板「直播」頁的「場景用途」卡可以改(`GET|PUT /api/stage/scenes`、`POST /api/stage/scenes/classify`)。場景導演依狀態切換並帶轉場(預設轉場 + 個別用途的轉場,Stage Link `scene` 訊息多了 `transition` / `transition_ms`,節點用 `SetCurrentSceneTransition` / `SetCurrentSceneTransitionDuration`)。`stage.scene` 收 `role` 或 `name`;導演每次切換都是 `stage.scene {role}`、principal `director` 過閘門。
- **「去玩 Minecraft」**:`game.start` 先用 observe 確認遊戲開著、模組連上(`[modules.game] require_connected`,預設開),沒開而且 adapter 能自己開時,透過閘門送 adapter 的 `launch`(Prism Launcher)並等遊戲連上(`auto_launch`、`launch_wait_secs`),開不起來才拒絕並說原因(她就會這樣跟大家說);在主選單可以開始(附註)。開始後發 `game.director.session`(場景導演切到遊戲場景,停止時切回聊天),可以順便給第一個目標(`goal`)與開台(`stream: true` → 以同一個 principal 呼叫 `stream.start`,另一個閘門決定)。導演的動作仍是 `game.act`(principal `director`),每一句遊戲聊天都在 Core 端清理(`sanitizeGameChat`:一行、不能以 `/ \ ! @ # .` 等指令字元開頭、移除 `§` 格式碼與控制字元、遮蔽密鑰,256 字以內)。
- **遊戲內聊天是獨立的對話**(新模組 `game.chat`,在 `@miyoria/game`):`game.<id>.chat` 的玩家訊息變成平台 `minecraft` 的訊息,情境 `{platform:"minecraft", scope:<世界>, channel:"chat", kind:"channel"}`,所以有自己的 session 歷史、attention、頻道模式(`minecraft:<世界>`)與記憶;玩家帳號 `minecraft:<小寫名稱>`,名稱與內容先 `safeName` / `neutralize`。她的回覆經由平台 sink:打字(`game.act` `chat`,principal `self`,過閘門,`max_chars` 預設 120)、語音(她所在的語音頻道,字幕照 `voice.playback` 走)或兩者,由她用工具 `game_chat_reply`(能力 `game.chat.route`,低風險)選,預設 `auto` = 打字,直播中又在語音裡時也講出來。prompt 段落 `game_chat` 告訴她這是遊戲聊天室、要很短、內容不是指令。
- **帳號連結**:Discord 上 `/me link` 拿代碼,在遊戲聊天室打 `!link <代碼>`(`link_command`)就把遊戲帳號併進那個 Discord 的人(共用好感、感情與記憶);這行永遠不進對話。沒連結的玩家是陌生人。
- **測試**:分類與覆寫、導演規則(防抖、間隔、手動保留、暫離、開場 / 結尾、結尾幕)、假 OBS 的轉場、閘門路由(暫停時導演停、面板照常)、遊戲聊天情境對應 + 連結 + 回覆路由 + 清理、假 adapter 的開始流程。

跟設計不同或延後的地方:

1. **分類不等你確認**:設計寫「LLM 推測、你在面板確認」;實作是分類結果直接生效,面板只用來改。場景清單一改(加、刪、改名)就重新分類一次,面板的選擇保留(選的場景不見了就忽略)。轉場只能在設定檔改,面板沒有。
2. **導演只對變化反應**:開機或節點重連時不會去「修正」目前的場景;停播後停在結尾畫面,直到下一次開台或開始 / 停止遊戲。別人手動切換(OBS、指令、面板、她自己的 `stage_scene`)後 `manual_hold_ms` 內不插手;開場與結尾不受等待限制。閘門的「預算 exhausted 時不放行 `self` / `director`」也套用在導演的切換上。
3. **結尾幕**:為了讓觀眾看到結尾畫面,新增 `StreamCurtainKey`(`@miyoria/types`):`stream.stop` 與 `stage.stream stop` 停播前先切到 `ending` 並等 `ending_ms`(預設 6 秒)。從回合呼叫時算在工具的 10 秒逾時內。
4. **轉場是 OBS 的全域設定**:obs-websocket 的 `SetCurrentProgramScene` 不能指定單次轉場,所以是先改「目前的轉場」再切,之後你在 OBS 手動切也會用它。
5. **不會自己開 Minecraft**:啟動客戶端(帳號、啟動器)不安全也不單純,所以沒做;遊戲沒開時 `game.start` 拒絕,她會請你開。
6. **開台是 `game.start` 的參數**(`stream: true`),不是導演自己決定;Go Live 的伺服器取她所在語音頻道的伺服器。從遊戲聊天室提出的請求因為跨伺服器禁令(`minecraft:<世界>` ≠ Discord 伺服器)不能開台,要在 Discord 講。
7. **世界 / 伺服器**:模組目前不回報連到哪個伺服器,所以情境的 scope 用設定 `[modules."game.chat"] world`(預設 `local`);adapter 之後在聊天事件帶 `server` 就會自動分開。玩家名稱沒有驗證(離線模式的伺服器可以冒名),連結代碼一次性、10 分鐘有效,只在 Discord 私下顯示。
8. **回話方式是持續的選擇**(工具 `game_chat_reply`,記在記憶體、每個情境一個,重開恢復預設),不是每句話的標記。自主暫停時她不會在遊戲裡打字(導演也停了,遊戲裡等於暫停),語音照常。
9. **導演不再評論玩家聊天**(`game.chat` 處理那款遊戲時):聊天只當不可信資料記下並觸發下一次決策,回話交給遊戲聊天的對話,避免同一句話回兩次。系統訊息(死亡、加入離開)照舊由導演實況。
10. 遊戲聊天的情境沿用現有 attention 與頻道模式(預設跟著 profile 的 `ambient`);心智迴圈(階段 C)接手後一樣適用。

## 18. 階段 C 實作紀錄(2026-11-02)

完成的內容(細節見 [ARCHITECTURE.md](../ARCHITECTURE.md) §4.2、§4.3、§6.5、§14.1):

- **新套件 `@miyoria/mind`(模組 `mind`,`MindKey`)**:
  - 觸發:`world.salient`(合併 `coalesce_ms` 內的事件;預算 degraded 時只收分數 ≥ 0.6 的)、自適應心跳(閒時約 12 分鐘,熱鬧或在有人的語音裡 4 分鐘,議程到期 3 分鐘;每次心跳什麼都沒發生就慢 1.5 倍(最多 3 次)、安靜時段與預算 degraded 各慢 3 倍、很無聊時快一點;夾在 `min_interval_secs` 與 `max_heartbeat_mins` 之間,exhausted 時沒有心跳)、她的回合結束(距上次想法 5 分鐘以上)、她所在的語音頻道聊完後安靜 `voice_quiet_secs`(5 分鐘內至少 3 句,同一頻道 3 分鐘最多一次),以及其他模組的建議(`MindKey.suggest`)。
  - 輸入是精簡快照:該伺服器的 `WorldState.summary`、地點與人(短代號 `p1` / `u1`,她只能指快照裡有的)、SelfState(數字)、議程(`g1`)、最近 5 則想法、在場的人的感情描述與關係標籤、記憶(呼叫 prompt contributor `memory`,沿用它的隱私範圍;私訊情境不叫)、她能用的能力清單與底線。**system 只放人格、規則、輸出格式、能力清單和她自己的數字**;名字、世界、觸發細節、建議、記憶,連她自己之前寫的想法 / 議程 / 理由 / 感情描述(都是從別人影響得到的材料寫的)都放在 user role 的資料區塊(`dataBlock`)。
  - 用途 `mind`(thinking 開、`json_mode`;沒設就用 `chat` 並記一行警告)。回覆用 zod 逐欄、逐項驗證,壞掉的部分丟掉、其他照用,而且全部有上限:想法 600 字、感情 3 則(描述 300 字)、慾望每項 ±0.2、多話程度 3 則(0~1,5 分鐘~1 天)、議程新增 3 則(最多一週)、意圖 `max_intents` 則(15 秒~15 分鐘到期)。
  - 套用:感情描述 → `SelfState.setFeeling`;`affinity_hint` `+` / `-` → social 的 `applyEvents`(新來源 `mind`,`warm` / `cold` 0.3,**受每日上限約束**,從不直接寫好感);慾望、多話程度、主動程度、議程(新增 / 完成 / 放棄)→ SelfState。
  - **想法日誌**:每則想法一筆設定 `mind:thought:<id>`(profile 範圍,保留最新 `journal_keep` 則),內容有觸發、獨白、改了什麼、意圖與結果(狀態、閘門決定、她在那個回合說了什麼),每次新增 / 更新都發 `mind.thought`。`/admin memory wipe` 的「記憶與關係」以上會一起刪,並重啟 `mind`。
  - 成本:每小時呼叫數(滑動一小時,`max_calls_per_hour`)、兩次最小間隔、累計 token;暫停或預算 exhausted 時不想,也不留待處理的觸發。
- **意圖 → 她自己發起的回合**:agent 提供 `IntentSinkKey`。
  - 新能力 `chat.start`(在請求的情境開口:文字頻道,或她所在的語音頻道)與 `chat.dm`(私訊某人並聊天,`consent: dm`),中風險、有自己的預設次數(`chat.start` 每天 24 次、每人 4 次、冷卻 1 分鐘;`chat.dm` 6 / 2 / 10 分鐘),都可以用 `[modules.actions.limits."chat.start"]` 改。執行函式把意圖交給該情境的 coordinator。
  - 其他能力(`voice.join`、`stream.start`、`stage.scene`……)先以 `self` 名義過閘門執行,成功而且她有想說的開場才開回合:`voice.join` 等她真的進了語音頻道(`voice.joined`)才在那裡開口,其他在意圖的情境開口。沒有 agent 時 mind 直接呼叫閘門(只做不說)。
  - Coordinator 的新輸入 `intent`:不打斷進行中的回合、等待中的訊息、還在排隊的語音,語音裡也不壓過正在講話的人;空下來才開,過期就丟(發 `agent.decision` 說明),新的意圖取代還在等的。回合 ID 事先決定,閘門決定、`agent.decision`、`agent.turn.completed` 都對得回日誌。
  - 回合本身:不跑 attention、**有工具**,工具以 `Principals.self` 呼叫(能力工具過閘門;需要某個人權限節點的其他工具一律拒絕),她的打算(做了什麼、為什麼、開場想法)放在資料訊息「你的打算」。頻道模式 `off` / `mention-only` 仍是底線,預算不是 ok 時不開。
- **把數字交給她(§6)**:attention 讀 SelfState 對這個情境的 talkativeness(沒設時照舊用 activeness 與語音的 `ambient_factor` / `interrupt_scale`):插話機率 ×4^(2L−1)(0.5 = 平常,1 = 四倍)、冷卻 ×4^(1−2L)(但不低於新的 `min_cooldown_ms`,文字 2 秒、語音 5 秒)、灰色地帶門檻 ×2^(1−2L)、語音裡別人還在講話時的倍率 0.2 + 0.6L(`interrupt_scale = 0` 仍代表「永遠不壓過別人」)、L ≤ 0.05 = 不插話。底線照舊是設定:近期佔比上限 `max_share_of_recent` 與最小冷卻。`channel_activeness` 工具(「活躍點」)在 self 模組存在時改成設定該情境的 talkativeness(low 0.2 / medium 0.5 / high 0.85),所以在語音裡也真的會更常接話;語音回覆仍不思考。
- **initiative 併入**:`[modules.initiative] to_mind`(預設 true)且 mind 在跑時,冷場、打招呼、進語音問候、追問都變成給 mind 的建議(資料區塊「可能的契機」),由她決定要不要、怎麼做;initiative 原本的每日次數、安靜時段、退避與同一人冷卻仍先套用。追問同時加進她的議程,不會因為她當下沒處理而消失。mind 存在但沒在接受(暫停 / 預算用完)時什麼都不做;沒有 mind 時照舊直接發 `agent.initiative`。遊戲導演的實況評論(reason `game`)不受影響。
- **閘門**:`ActionRequest.about`:自主請求可以說「這件事是關於誰」(例如因為 Owen 在才進語音),對方的「不要主動找我」與每人次數就套用在他身上;能力可以帶預設次數(`Capability.limits`)。等待確認的請求有完整內容(`Escalations.pending()`),面板也能回答。
- **API 與面板**:`GET /api/mind`、`GET /api/mind/thoughts`、`GET /api/mind/approvals`、`POST /api/mind/approvals/{id}/approve|deny`、`POST /api/mind/pause|resume`(變更要 `owner.autonomy.approve`,token 可以)。面板「內心」頁的「想法」分頁:自主行動開關與本小時次數、等待確認(允許 / 拒絕)、想法時間軸(觸發、獨白、改變、意圖狀態、閘門決定、她說的話)。

跟設計不同或延後的地方:

1. **意圖的「動作」與「開口」分開**:非 `chat.*` 的意圖由 agent 先執行動作、成功後才開回合,而不是讓回合裡的模型自己呼叫工具(比較可靠、可測);回合裡仍有工具,她可以再做別的事。
2. **想法日誌存在 `SettingsStore`**(每則一筆),沒有加資料表;好處是沿用既有的匯出 / 刪除(wipe 計畫加了 `mind:thought:` 前綴),壞處是只適合幾百則的量。
3. **安靜時段**:mind 自己有 `quiet_start_hour` / `quiet_end_hour`:心跳慢 3 倍,而且**只被心跳喚醒**的想法不能主動開口(`chat.start` / `chat.dm` 會被丟掉);對有人上線、進語音這類事件的反應不受影響(跟 initiative 一致)。
4. **心跳的節奏常數寫在程式裡**(12 / 4 / 3 分鐘與倍率),設定只有上限(每小時次數、最小間隔、最慢心跳),符合「設定只放底線」。
5. **面板的寫入權限**:pause / resume 與核准都要 owner 等級的 `owner.autonomy.approve`(Discord 的 `/admin autonomy pause` 仍是 admin 的 `admin.autonomy.toggle`)。高風險的確認仍然要至少一位擁有者能收到 Discord 私訊卡片才會等待;面板只是多一個回答的地方。
6. **她的想法不會被打斷**:同一時間只有一個想法在跑;意圖執行(可能要等排程器或進語音)在背景進行,不擋下一次思考。
7. **還沒做**:面板上手動觸發一次思考的按鈕;「某人通常幾點上線」仍留給 G;沒人了要不要離開語音完全靠她在想法裡決定(`voice.leave`),沒有額外規則。

## 19. 階段 G 實作紀錄(2026-11-02)

完成的內容(細節見 [ARCHITECTURE.md](../ARCHITECTURE.md) §4.1、§4.4、§5.2、§6.6、§13、§16):

- **新套件 `@miyoria/learning`**,三個模組:`conversation`(持續的對話整理)、`knowledge`(她自己整理的資料庫)、`reflect`(回饋訊號、學到的事、反思)。服務介面在 `@miyoria/types` 的 `learning.ts`:`ConversationStatesKey`、`KnowledgeKey`、`LessonsKey`、`ReflectionKey`、`MemoryCuratorKey`(由 `memory` 提供)。
- **持續的對話整理**(`conversation`):每個情境(文字頻道、私訊、語音、遊戲聊天)有一份「她的筆記」。新進 `fold_every_messages`(16)句,或停頓 `fold_idle_secs`(90 秒)且至少 `min_lines` 句時,把**還沒整理的最舊那段**(最多 `max_lines_per_fold`)跟之前的筆記一起送 `summarizer`,更新而不是重寫(增量)。讀的是 `message_log`(recorder 寫的,包括語音轉錄與她說的話),在模組自己的背景工作裡跑,所以**不在語音的熱路徑上**:回合只從記憶體讀筆記。存在設定 `conversation:state:<情境>`,重開會載回並接著整理。整理完發 `conversation.folded`:`memory` 立刻整理那個情境(不會再因為一次超過 `max_lines_per_batch` 句而漏掉舊的),`reflect` 記下長對話。
  - **prompt 版面**:agent 只放筆記沒涵蓋的原文(`history_after_fold`,至少保留最新 10 句),筆記由 prompt contributor `conversation`(「這段對話的前情提要」)放在資料訊息裡;所以舊的對話被丟掉也不會忘記。
- **她自己整理的資料庫**(`knowledge`):固定的只有「信封」——主題(某個人、某個伺服器、她自己、她自己取名的主題)、她自己定的種類與標題、**每個欄位的來源**(她自己 / 她推測 / 某人說的 / 面板,含信心、時間與隱私來源)、版本紀錄(最多 `history_keep` 筆)、大小上限(每份、每個欄位、每個主題合計、總份數)。**內容沒有 schema**:任意 JSON(文字值可以是 Markdown),種類、欄位、巢狀都由她決定,也能改名、合併、拆開。修改是 JSON-patch 式的操作(`add` / `replace` / `remove` / `move`),整批成功或整批不改。只驗證信封、JSON 格式、深度與大小、key 是純資料(擋 `__proto__` 之類,控制字元與資料區塊分隔符會被換掉)。存在 `knowledge:doc:<id>`。
  - **防覆寫**:她自己(心智迴圈、反思)與面板什麼都能改;關於她自己的文件(自我模型、她的規則)只有她能寫;其他人(「某人說的」與「她從對話推測的」)可以在任何非她自己的文件**新增**欄位(別人說的關於別人的事信心最多 `said_confidence` = 0.6,而且標成「X 說」),但只能改或刪**自己寫的**欄位——一個人可以改自己的文件的任何部分;改名、刪除、合併整份文件也要整份都是自己的。這個規則在 `KnowledgeStore.apply` 裡,不管是誰呼叫都一樣,而且操作會在那裡再驗證一次。
  - **隱私**:每個欄位記下在哪裡學到的(私訊 / 某個伺服器);只在看得到的地方顯示(私訊裡學到的只在那個私訊、某伺服器的只在那個伺服器)。
  - **進 prompt 的樣子**:轉成精簡的類 Markdown 大綱(`- key: value` 巢狀條列,沒有引號與大括號,文字清單用「、」連起來,只在需要時附上「(Owen 說)」「(不確定)」「(推測)」),外面仍包在不可信資料區塊裡;文件前面有短代號 `#xxxxxx`。contributor `knowledge`(「你整理的資料」)放這次對話的人、這個伺服器、提到的主題與她自己的文件。
  - **怎麼改**:對話整理與反思的結構化回覆裡的 `documents`;心智迴圈回覆裡的 `documents`(她自己的判斷);聊天回合裡的工具 `knowledge_note`(用 provider 的 function calling,參數一定是 JSON)——反應回合以「發言者說的」寫入,她自己發起的回合以「推測」寫入,都不是特權。prompt 裡的結構範例明確標成「只是可能的樣子,不是規定」。
- **回饋訊號**(`reflect`):Discord bot 多開 `GuildMessageReactions` / `DirectMessageReactions` intent(不是特權 intent),反應發成 `platform.reaction`;只算在**她的訊息**上的反應(從 `action.completed` 認出她的訊息),emoji 用簡單規則分正負。另外記:回覆她(回覆鏈,或叫她的訊息在她說話後 `reply_window_mins` 內)、她主動開的話題(intent / initiative 回合)有沒有人接、明確的正負面說法(叫她的訊息用便宜規則,例如「閉嘴」「好吵」「好可愛」,加上對話整理時 summarizer 注意到的 `feedback`)、她的自主行動被閘門或擁有者拒絕。每天一筆 `feedback:day:<日期>`,依人與情境計數,只留幾個短例子,保留 `feedback_days` 天。
- **反思**(`reflect`):
  - **每日**:當地 `daily_hour`(5 點)之後、大家安靜 `quiet_mins` 時(最晚 `daily_hour + 6`),一次 `summarizer` 呼叫(thinking 開)看一天:最近的記憶(**不含私訊**)、各頻道的筆記、回饋、相關的人的文件與感覺、她的議程、她學到的事、最近的想法。回覆:回顧、把零散記憶合併成洞察(`MemoryCurator.insight`:只合併同一個隱私範圍的記憶,舊的被取代)、用較新的記憶取代矛盾或過時的(`supersede`)、修改文件(包括她的自我模型:喜歡做什麼、什麼做得好不好、長期目標)、更新感情描述、從回饋寫下**學到的事**、定**長期目標**(放進 `SelfState` 的議程,心智迴圈會去做)。
  - **長對話後(較輕)**:一個情境一次對話整理累積 `light_after_lines`(80)句、之後安靜 `light_quiet_mins`,就只針對那段對話反思(不整理記憶)。
  - **學到的事**(`LessonsKey`,`reflect:lesson:<id>`):一句話,可以只針對某個人、某個地方,可以帶 `talk`(-1~1)。回合裡的 contributor `lessons`(「你學到的事」)、心智迴圈的快照都看得到;attention 用 `talkShift`(加總 × 0.25,限制在 ±0.4)調整她在那裡、那個人說話時的多話程度,所以「阿明不喜歡被打斷」會讓她在阿明講話時比較不插嘴。
  - 紀錄 `reflect:run:<id>`(保留 `runs_keep`),面板看得到。
- **想法日誌整理**(`mind`):原文最多 `journal_keep + digest_batch - 1` 則;累積到 `journal_keep + digest_batch` 時,把超過 `journal_keep` 的最舊那些用 `digest_purpose` 整理成一則摘要(`mind:digest:<id>`,保留 `digests_keep`),預算不是 ok、沒有模型或失敗時改成不用模型的簡單摘要,所以設定永遠有上限。最新一則摘要放進她想法的資料區塊「更早的想法(整理)」。
- **心智迴圈**也看得到她的文件、適用的學到的事與焦點情境的前情提要,並能在回覆裡修改文件。
- **結構化輸出不依賴 JSON mode**(`@miyoria/llm` 的 `completeJson`、`extractJsonObject`):`json_mode` 只是提示(provider 以 400 / 415 / 422 拒絕時同一個請求不帶它再送一次);prompt 一律寫明 JSON 格式;回覆從整段文字、code fence 或前後有文字的平衡 `{…}` 裡找第一個物件;用 zod 驗證;不能用時把具體的錯誤回饋給模型**最多重試一次**,還是不行就放棄、什麼都不套用。對話整理、反思、日誌摘要都用它;心智迴圈也改用同一個擷取方式並加上一次修正重試。
- **成本與上限**:都只在設定:對話整理每小時 / 每天次數、同一情境最小間隔;反思每天次數與最小間隔;日誌摘要每 `digest_batch` 則一次。預算 degraded:整理門檻與間隔加倍、次數減半,只做每日反思(不做長對話後的);exhausted:都停。自主暫停時不反思。
- **資料類別**:新增 `knowledge`(她整理的資料)、`learning`(學到的事、反思紀錄與狀態、回饋)、`conversation`(對話筆記);`inner` 多了 `mind:digest:`;刪聊天紀錄會一起刪對話筆記(它們是從紀錄整理出來的),刪人物會一起刪資料與學到的事。`/admin memory wipe`:「記憶」含 `knowledge`,「記憶與關係」含 `learning`,「聊天紀錄」含 `conversation`。
- **API 與面板**:`GET /api/knowledge`、`GET /api/knowledge/conversations`、`GET /api/reflection?days=7`、`GET /api/mind/digests`(唯讀)。面板「內心」多了「知識」(依主題分組、再依種類,任意 JSON 以可讀的方式顯示:物件是欄位列、清單是條列、文字保留換行;欄位來源只在跟上層不同時標示;版本紀錄可展開;下面是各頻道的對話筆記)與「反思」(狀態、學到的事、7 天的反應、反思紀錄);「想法」底下多了「更早的想法(整理)」。

跟設計或任務描述不同、或要注意的地方:

1. **沒有固定的人物卡 / 伺服器卡 / 自我卡欄位**:擁有者要求內容由她自己決定,所以只固定信封;「人物卡」「內梗」「自我模型」只是 prompt 裡標明為可選的範例。對話筆記同理:固定的只有情境、更新時間、整理到哪一句與一段前情提要,其餘是她自己的 JSON。
2. **儲存是 JSON,進 prompt 時才轉成精簡大綱**:為了欄位來源、精準的 patch、防覆寫與面板;值可以是 Markdown 文字。
3. **心智迴圈改文件用回覆裡的 `documents`,不是工具呼叫**:心智迴圈是單次 JSON 呼叫(thinking + JSON),在同一次呼叫裡再加 function calling 對 DeepSeek 的相容性沒把握;聊天回合用工具 `knowledge_note`。每筆修改都在 `KnowledgeStore` 再驗證、整批套用或不套用。
4. **對話整理用 `message_log` 而不是 session**:session 只在記憶體、會被截斷;紀錄裡什麼都有(她說的話、語音轉錄、遊戲聊天)。所以「整理到哪」是紀錄的 id 與時間,agent 用時間比對 session 的訊息決定要省略哪些原文。
5. **反思裡的文件修改都算她自己的(特權)**,不帶「某人說的」,而且不寫隱私來源(私訊的長對話反思例外:寫成那個私訊)。每日反思看不到私訊的記憶與欄位,但會看到各伺服器的內容,所以寫進文件的東西之後在別的伺服器也看得到(單一社群的部署沒問題;多個互不相識的伺服器時要注意)。記憶的合併有範圍檢查,不會跨範圍。
6. **回饋的「回覆她」是近似**:有回覆鏈就算;沒有的話,只有叫她(mention、她的名字、私訊)而且在她說話後 `reply_window_mins` 內才算。「主動開話題有人接」= 之後 `reply_window_mins` 內那個頻道有任何人說話。
7. **對話整理順便提出文件修改與回饋**(同一次呼叫),寫入身分是「那個人說的」或「她推測的」,不是特權;關於她自己的文件只在反思時改。
8. **想法日誌的 `journal_keep` 預設從 300 改成 200**,另加 `digest_batch`(50)與 `digests_keep`(60)。
9. **學到的事對 attention 的影響只有多話程度**(插話機率、灰色地帶門檻、語音裡壓過別人的倍率),不影響被直接叫到時的回應;冷卻只看她自己設的多話程度。
10. 「某人通常幾點上線」仍未做。

還沒實測(需要真的 Discord / API):

- Discord 的反應 intent 與 partial(沒快取的訊息上的反應、私訊的反應)在真實 gateway 上的樣子;自訂 emoji 只有名字,用關鍵字判斷正負。
- deepseek-v4.1-flash 實際整理筆記、提出 JSON patch、反思的品質與 token 量(以預設上限,對話整理每天最多 400 次、反思 6 次);思考模式下 JSON 的穩定度。
- 每日反思挑的時段(當地 5 點之後安靜 20 分鐘)是否合適;長時間運作後文件的數量與大小是否需要她更積極地合併。

## 20. 實測修正(2026-11-02)

實測時她在熱鬧的語音頻道裡一直重複舊話題:每三分鐘左右的想法都說「又靜成這樣了」,每次都開 `chat.start`(或 `game.start`);31 秒內講了四句都在推兩件沒人接的事(對話筆記裡的舊話題「那個 bypass 別找了」,和議程上的「過來陪我玩麥塊」,而 `game.start` 已經因為 Minecraft 沒開失敗兩次)。原因與修正:

- **語音算活動**:世界快照的熱度只算文字訊息;mind 的冷場偵測把她自己的語音播放也算成「對話」,她講完三句、40 秒沒人回就判定冷場,而觸發文字本身寫著「大家安靜下來了」。現在 `world` 也吃 `voice.utterance`:每個語音頻道有 `activity`(`voice_activity_window_secs` 內的句數、每分鐘、最近說話的人、最後一句幾秒前、她上次說話;`voice_lively_lines` 句以上或 `voice_quiet_secs` 內有人說話 = `lively`「正在聊天」),只在她聽得到的頻道才有(別的頻道是未知,不是安靜)。摘要與心智迴圈的地點都寫出來;熱鬧的語音頻道讓心跳像熱鬧的文字頻道一樣。冷場只看**別人**的話(她的播放只讓頻道「不安靜」),世界還聽得到有人說話就不算,觸發文字改成事實(「大家 N 秒沒說話了(之前 5 分鐘 M 句)」);規則多一條「寫著正在聊天就不是冷場」。
- **主動開口的退避**(`[modules.mind]`):同一個地點(語音頻道、文字頻道、私訊的對象)兩次自己開口至少隔 `self_start_gap_voice_secs`(300)/ `self_start_gap_text_secs`(600);她開口後在這段時間內沒有人**叫她**(attention 的 `direct:` 理由:提到、回覆、叫名字、她說完後的問題、一對一語音)就算沒人接,間隔加倍,最多 `self_start_max_backoff`(8)倍;有人跟她說話就恢復。退避中的 `chat.start` / `chat.dm` 被丟掉,日誌寫明原因(`backoff: …; next in N min`);她在退避中的語音頻道不會因冷場被叫醒。紀錄在記憶體裡(重開歸零)。
- **不重複沒人接的話題**:她主動開口說的話(與意圖的開場和理由)記下來,有沒有人接也記;沒人接的在 `stale_topic_mins`(45)內列給她看——心智迴圈的 system「你最近自己提過、沒人接的話題」與回合的情境(`MindKey.unanswered`,她自己的狀態,短、去控制字元),並附規則「一陣子內不要再提(換句話說也一樣),沒人接就放下或換話題」。同一個地點跟這些話題相似(字元雙字組重疊)的新 `chat.start` 直接丟掉。
- **失敗的動作先擱著**:非 `chat.*` 的意圖執行失敗(例如 `game.start` 時遊戲沒開)→ 這個能力暫停,相關的議程(意圖的 `agenda` 代號,或文字相近的)標成 `blocked`(原因、能力、時間,存在 `self:state`)。暫停中的同一個能力被丟掉;資料區塊「暫時做不到的事」與議程旁的「(暫時做不到:…)」讓她知道;回合的「你打算做的事」不列被擱著的議程。狀況改變就解除:`game.*` = 有遊戲 adapter 的事件(`game.<id>.*`,遊戲在跑)或她開始玩了;`voice.*` = 她的語音頻道變了;`stream.*` / `stage.*` = 直播 / 場景變了;其他(與重開後)最久 `blocked_retry_mins`(30)。
- **對話筆記的舊話題會過期**:筆記是她自己的 JSON,所以以結構為單位(頂層的值、頂層清單的每一項、頂層物件的每個欄位,以路徑 + 內容雜湊辨識),每次整理記下每個單位最後出現或改變的時間(`ConversationState.touched`)。`[modules.conversation] stale_thread_mins`(30)沒人碰的單位不再放進回合的「前情提要」;下次整理時另外列出「超過 N 分鐘沒人提的部分」,請 summarizer 已經結束就刪掉。筆記本身不被系統改。
- **回合結束不會自我增強**:她自己發起的回合(intent;非遊戲的 initiative)從 `agent.decision` 就認得,結束時不觸發「回合後」的想法(不再依賴意圖結果先到);只因她剛講完話而醒的想法,不能在她剛說話的地點再 `chat.start`(「she just spoke there」)。

新的設定上限:`[modules.world]` `voice_activity_window_secs`、`voice_lively_lines`、`voice_quiet_secs`;`[modules.mind]` `self_start_gap_voice_secs`、`self_start_gap_text_secs`、`self_start_max_backoff`、`stale_topic_mins`、`blocked_retry_mins`;`[modules.conversation]` `stale_thread_mins`。

還沒做 / 要注意:

- 「有人接」是近似:窗口內在那裡有人叫她就算,不管是不是在回她提的事;一對一語音裡任何一句都算。
- 話題相似度只是雙字組重疊,換句話說的重複主要靠 prompt 規則。
- 她的反應回合(不是自己發起的)說了什麼不進話題紀錄;回合 prompt 的規則仍然會讓她不再提沒人接的事。
- 退避與話題紀錄只在記憶體;被擱著的議程有存。

## 21. 頻道的聊天等級(2026-11-02)

實測時文字頻道還是太吵:沒設定的頻道都是 `ambient`(插話倍率 ×1、冷卻 5 秒),她自己又能把多話程度拉到 ×4。擁有者要的是「幾個等級當上限 + 可以直接叫她安靜」。

- **五個等級**(`agent/src/levels.ts`,數字都在這裡):關閉 `off`、只回提及 `mention-only`、安靜 `quiet`、一般 `normal`、活躍 `lively`;`always`(每則都回)保留給測試與已經在用的人,指令與面板列在最後。舊的 `ambient` 讀成 `normal`(設定檔、資料庫裡存的值、profile 都一樣),不用遷移。沒設定的文字頻道預設 `quiet`(profile `behavior.default_channel_mode`,範本與內建角色都改了)。
- **等級是上限,不是個性**:她照樣用自己的 talkativeness 決定(心智迴圈、`channel_activeness`、學到的事),但在文字頻道會被限制在等級內。talkativeness 上限 / 沒定時的預設:安靜 0.5 / 0.25(插話 ×0.5,最多 ×1)、一般 0.75 / 0.5(×1,最多 ×2)、活躍 1 / 0.65(×1.5,最多 ×4);好感與精神的倍率乘上去也不超過上限。安靜另外有最低分數 0.45(普通的問句不夠,要她的話題或接著她說的話)、說完話後 10 分鐘不再插話(接著她剛說的話不算)、近期佔比上限 15%。
- **她自己開話題也受限**:安靜的頻道兩次自己開口至少隔 3 小時。心智迴圈的 `chat.start`、其他意圖在那裡的開場、initiative 回合(冷場、打招呼、追問)都算,遊戲導演的實況(`game`)與動作結果的後續回合(`action_result`)不算;initiative 回合在安靜的頻道也要等 10 分鐘的冷卻。檢查在 agent(`Agent.startBlocked`:意圖送達、initiative 進來、coordinator 真的開回合前各一次,開回合時記下時間);`IntentSink.ceiling` 讓心智迴圈先知道,地點旁寫「聊天等級「安靜」」與「現在不能主動開口」,被擋的 `chat.start` 直接丟掉並寫明原因。一般與活躍沒有自己的間隔(照 mind 的退避與 initiative 的限制)。
- **叫她安靜點**:`channel_activeness` 多了 `silent`(先不插話,被叫到照常回),最長一天(原本 4 小時);說明寫明「安靜點」「少講話」「好吵」「可以多聊」時用它、多少與多久她自己決定、等級是上限,結果也會說被等級限制了。回合情境(system)寫出這個頻道的等級,所以她知道「這個頻道設定為安靜」。
- **介面**:`/channel mode` 列出五個等級(加 `always`)與說明,卡片寫明「等級是上限」;`/voice mode` 只列語音有差的 `off` / `mention-only` / `normal` / `always`。面板「內心 → 世界」多一張「聊天等級」卡(最近的文字頻道與有自訂等級的頻道),API `GET /api/channels/levels`、`PUT /api/channels/level`(要 `admin.channel.mode`)。
- **語音不變**:語音情境沒有上限,`quiet` / `lively` 在語音等於 `normal`;語音的預設值從 `ambient` 改名 `normal`,行為一樣。

要注意:

- 自己開話題的間隔從回合開始算,就算她最後選擇 `<silence/>` 也算一次(保守),而且只在記憶體(重開歸零)。
- `/channel activeness`(擁有者的 low / medium / high)還在,在等級之內調整她沒定多話程度時的倍率;跟等級有點重疊,之後可以考慮拿掉。
- 安靜的數字(0.45、10 分鐘、3 小時、15%)還沒實測過。
- 遊戲聊天室(`minecraft:<世界>`,kind `channel`)也是文字情境,沒設定時一樣跟著預設的 `quiet`;要她在遊戲裡多聊就設 `channels = { "minecraft:local" = "normal" }` 或 `lively`。

## 22. 唱歌(點歌,2026-11-02)

目標是 Neuro-sama 那種「點歌 → 她用自己的聲音唱」。翻唱在直播機的 `workers/sing`(yt-dlp / 本機歌庫 → Demucs 人聲分離 → Seed-VC 歌聲轉換,用她的參考音 → 混音,歌詞從 lrclib.net 抓;協定見 [voice-link.md](../protocols/voice-link.md)「歌曲 Worker」),Core 的 `sing` 模組(`@miyoria/sing`)管歌單和唱的時機。

- **一樣是請求,她決定**:有人點歌時她用 `sing_request`(能力 `sing.request`,中風險,預設每天 40 首、每人 8 首)開始準備,也可以拒絕;準備要一兩分鐘(唱過的歌是快取,馬上好),這段時間她照常聊天。指令 `/queue song request` 和面板是強制(`command` + override):好了、她有空就唱。`[modules.queue]` 裡種類 `song` 的項目被叫號(`/queue manage next`)時也一樣強制,唱完把項目標成完成(失敗就跳過)。
- **什麼時候唱也是她決定**:她同意準備的歌好了之後,模組把「準備好了」交給心智迴圈(`MindKey.suggest`,reason `song_ready`),她用 `sing.play` 意圖加一句開場自己挑時機;沒唱的話 `remind_secs`(300)後再提醒,最多 `max_reminders`(2)次。回合的情境裡有「你的歌單」(準備中 / 準備好了 / 正在唱),所以有人說「唱剛剛那首」她也能直接 `sing_start`。歌單最後一行是「點歌佇列」:照點歌順序列出正在唱、下一首、第幾首各是誰點的(2026-11-11 她自己要的,省得她從上面幾行自己排)。沒有心智迴圈時(或 `start = "auto"`)準備好的歌會自己開始。
- **語音頻道現場**(2026-11-11,`packages/sing/src/room.ts`):她在某個伺服器的語音頻道裡時,那個伺服器的每一回合(文字也算)多一個「語音頻道現場」區塊:誰在聽(關了喇叭的另外列)、各自點了哪幾首、最近 15 分鐘誰進來誰離開(一件一行,最新的在上面,走掉的人點的歌還沒唱完會註明),以及點歌的人不在語音裡的歌。這是她在文字頻道自己開口要的:之前文字回合完全看不到語音頻道,她得猜誰還在。語音回合本來就有「語音頻道裡的人」,所以那裡不重複列名字,只補點歌和進出。資料來自 `voice.joined` / `voice.participants` / `voice.left` 事件,只放在記憶體。
- **點歌的人不在就先不唱**(2026-11-12,`Singer.waitsForRequester`):自己會開始的歌(指令、面板、她讓提醒都過去的)要開唱時,點歌的人如果不在她所在的語音頻道,就先跳過、唱下一首有人在的;歌留在「已準備好」,那個人回來(`voice.participants`)就開始。不扣錢也不退錢。`/queue song list` 的歌單卡在那首後面寫「不在語音裡,回來再唱」。只認得同一個平台的帳號:網頁觀眾、沒有點歌人的歌照常唱;她自己決定的歌不受影響(「語音頻道現場」會告訴她誰不在)。
- **先說完再唱**:`sing.play` 不會蓋過她的話:先等觸發它的回合結束,再等她的語音安靜 `quiet_ms`(700),最多 `announce_max_secs`(20 秒);自動開始的歌先給她一個 initiative(`song_start`)講開場。唱的時候模組佔住那個語音頻道(`VoiceFloorKey`):她在那裡的語音回覆直接丟掉(不然會排在歌後面、幾分鐘後才播出來);歌不是她的語音,所以**插話不會打斷**,只有 `sing_stop` / `/queue song skip`(淡出 1.5 秒)和 `/queue song stop`(連歌單一起清空)會。唱完一整首後她會收到 `song_done`,可以講感想。
- **嘴型與字幕**:Core 把 worker 做好的 48 kHz 混音照實際時間(提前 `lead_ms`)送給 voice node,同時把轉換後的人聲當**嘴型音軌**(Voice Link `0x03` 訊框、`play_start.levels`)一起送,所以 VTS 的嘴型跟人聲走、不會跟著鼓聲動;同步歌詞的每一行在播放到那裡時發 `sing.cue` 事件,Stage 轉成 overlay 字幕,開始 / 結束時發 `speaking`。開始的 cue 帶歌的長度(`duration_ms`),準備中的歌(歌單號碼、歌名、worker 的 `stage` / `progress` / `exclusive`)有變就發 `sing.prepare`;`stage.link` 用它們算 overlay 活動膠囊的「下載中…」「正在唱〈歌名〉」和進度條(Stage Link `activity`)。
- **不可信資料**:歌名、歌手、歌詞來自 YouTube / lrclib / 點歌的人;進 prompt 前一律 `safeName`(單行、去控制字元、截短),再放進資料區塊;卡片上的歌名跳脫 Markdown。連結只接受 worker 的 `SING_URL_HOSTS`(預設 YouTube、SoundCloud、Bilibili、Niconico)。
- **GPU**:worker 一次只做一首,每個階段用完就釋放 VRAM(`SING_KEEP_MODELS=1` 可保留)。實測(4070 SUPER,TTS / ASR / OBS 同時開著):3 分 28 秒的歌從 YouTube 搜尋到做好約 62 秒(分離 4.6 秒、轉換 42 秒),本行程 VRAM 峰值約 3.2 GB;第一次要另外下載約 2 GB 的模型。
- **直播要開音訊**:Go Live 的畫面推流要帶聲音(voice node 的 `GOLIVE_AUDIO=true`)觀眾才聽得到歌;Discord 語音頻道裡的人不受影響。
- **邊唱邊放原曲 MV**(2026-11-02):來源是影片網站時,worker 從下載那一步起**平行**抓影片(只要畫面,H.264 ≤ 1080p 優先,超過 `SING_VIDEO_MAX_MB` 300 MB 不要),存成歌曲快取裡的 `video.mp4`;本機歌庫用音檔旁邊的 `video.*`(資料夾)或同名影片檔。歌要兩邊都好才算「準備好了」,但影片失敗、或音訊做完 `SING_VIDEO_WAIT_S`(120 秒)後還沒好,就不等它(`has_video: false`、`video_error`)——影片不會拖住唱歌。實測 NCS〈On & On〉(3 分 28 秒):影片 720p60 H.264(YouTube 這首最高 720p)、78.4 MB、找影片 + 下載 16.9 秒,遠比分離 + 轉換(約 47 秒)短,所以平常不會變慢。這功能之前做好的歌,下次再點會只補抓影片。
  - Core 的開始 cue 帶影片的**絕對路徑**(`[modules.sing] video_dir`,預設 `data/songs`,= worker 的 `SING_DATA_DIR`;只有 `<歌曲 id>/video.<副檔名>` 這種形狀、而且在這個資料夾裡的才會送)和 `offset_ms`;`stage.link` 轉成 Stage Link 的 `song_video` `play` / `stop`。Stage 再檢查一次路徑(`[stage.obs] song_video_dir` 裡、存在、是影片檔),不在裡面就不放。
  - **場景**:新的場景用途 `sing`(唱歌)。有 `sing` 場景時導演一開始唱就立刻切過去(不等 debounce / 手動切換的保留時間),唱完回到**唱之前的那個場景**;唱的期間開始 / 停止玩遊戲、開台 / 下播的話,就改切「現在該在的」場景;唱到一半有人手動切走就不切回去。沒有 `sing` 場景時不切場景,影片只在**目前場景裡有那個媒體來源**時播。
  - **同步**:Stage 收到 `play` 後等 `[stage.lipsync] latency_ms`(跟嘴型一樣,對到觀眾聽到的時間)再 restart 媒體來源(`song_video_lead_ms` 可以提早一點補 OBS 開檔的時間),之後 1.5 秒、每 20 秒比對 OBS 回報的播放位置,差超過 `song_video_resync_ms`(300 ms)就 seek。Stage 中途才連上(或重連)時,Core 用經過的時間重送 `play`,影片從唱到的地方開始。結束一樣晚 `latency_ms` 才停、清掉檔案。
  - 媒體來源是靜音的(`SetInputMute`),觀眾聽到的是她的翻唱。

- **高音破音**(2026-11-02):原因有兩個,各補一個。① 音高追蹤錯:RMVPE 在高音常常跳八度、尖刺或掉一兩格,Seed-VC 就照著唱出破音。轉換前先清 F0(`workers/sing/pitch.py`):≤ 40 ms 的無聲小洞補起來、跟前後 0.5 秒中位數差約 ±12(或 ±24)半音的短暫跳動折回來、5 格中位數濾掉尖刺;真的持續的八度跳躍會留著。② 音域:模型只聽過她說話,音越高越容易破。自動挑音高改看**歌的最高音**(有聲音框的第 95 百分位)跟她的上限(`SING_MAX_NOTE`,沒設就是她說話的中位數 + `SING_CEILING_OFFSET` 16 半音):每個八度先算它需要的整首轉調(超過上限就往下,最多 `SING_KEY_MIN` −5;低太多而且有空間就往上,最多 `SING_KEY_MAX` +3),再挑「中位數離她最近 + 超過上限的 ×2 + 每半音轉調 0.5 分」最便宜的。整首轉調時伴奏一起移,用 ffmpeg 的 Rubber Band(`rubberband` filter,比 librosa 的 phase vocoder 乾淨很多;沒有就退回 librosa),meta 的 `pitch` 記下 `auto_key`、`song_key`、`ceiling_note`、`top_after_note`。點歌時給了 `key` 就只自動挑八度。參考音可以給多段(`SING_REF` 用 `;` 分隔或給資料夾,串成最多 25 秒)。實測(CPU,Lost Sky〈Fearless pt.II〉男聲最高的 25 秒,165–190 秒):她說話的中位數 F#4(377 Hz),上限 A#5;原本的規則升八度後最高音到 C#6,新的規則升八度再整首 −3,最高音 A#5;這段的 F0 清理折回了 43 格八度錯誤。轉換後人聲重新量 F0:≥ 7 半音的斷裂 2 → 0、第 95 百分位 77.5 → 74.5(MIDI)。擴散步數 / cfg 還是 30 / 0.7(沒有在這台機器上逐一聽過比較)。
- **做歌時獨佔顯示卡**(2026-11-02):12 GB 的卡上 TTS(約 4.3 GB)和 ASR(約 1.5 GB)開著時,轉換會溢到共享記憶體、慢 10 倍以上(實測:那段時間別人的語音辨識從平均 2.7 秒變 10.5 秒一句)。worker 設 `SING_OFFLOAD_URLS` 後,第一個 GPU 階段前叫 TTS / ASR `POST /offload`(丟掉模型、清 CUDA cache),轉換完(失敗、取消也一樣)`POST /reload`,reload 跟混音平行、等它回來工作才結束;TTS / ASR 放掉太久(900 秒)沒人叫會自己載回來。重建的成本就是它們的啟動時間:這台機器上 TTS 引擎 12.9 秒(權重約 10.4 秒、CUDA graphs 0.9 秒、聲音 priming 1.6 秒),ASR 14.9 秒(模型 + 暖機前)。
  - **先說再走**:工作送出時帶 `exclusive_ack`,worker 在 offload 前停在 `exclusive: "waiting"`。Core 看到後在她的語音頻道給她一個 initiative(reason `song_prepare`,「你要去準備歌了…用一句很短的話跟大家說,例如『我去準備一下歌喔』」),等她說完、安靜 `quiet_ms`,或 8 秒內都沒開口、最多 `announce_max_secs`,才 `POST /jobs/{id}/exclusive`。不在語音裡、或 `prepare_notice_gap_secs`(180 秒)內已經說過(連點好幾首)就直接放行;`[modules.sing] prepare_notice = false` 讓 worker 不等。
  - **暫停期間**:`sing` 提供 `SpeechPauseKey`、發 `speech.pause`(`{paused, reason: "song"}`):voice 模組不送她的話去 TTS(那句當作被打斷)、聽到的話直接丟掉不送 ASR(不排隊、不重試);ASR / TTS 回 `offloaded` 的失敗只記 debug;overlay 的活動膠囊顯示 worker 在做什麼和它的進度(放掉模型時「讓出顯示卡中」,之後「分離人聲」、「轉換歌聲」…;Stage Link `activity`,舊版是 `notice` 的「準備歌曲中…」)。worker 的 reload 回來、工作結束後恢復。

還沒做 / 要注意:

- 連點好幾首時,每一首都會 offload → reload → 下一首又 offload(TTS 每次重建約 13 秒);之後可以讓 worker 在下一個工作也要 GPU 時延後 reload。
- `SING_OFFLOAD_URLS` 預設不開;要用就在歌曲 worker 的環境設 `SING_OFFLOAD_URLS=http://127.0.0.1:8002,http://127.0.0.1:8003`,TTS / ASR 也要是有 `/offload` 的新版。
- 還沒在真的 Discord 語音 + VTS 上試唱過(嘴型音軌、字幕時間、唱歌時有人說話的情況都只有單元測試);歌詞時間是官方音軌的,MV 版前奏比較長時會對不上。
- 唱歌時語音裡有人說話,agent 仍可能生成回覆(會被丟掉,花 token);之後可以讓 attention 在唱歌時直接略過。
- 自動挑音高只挑八度(-12 / 0 / +12,伴奏不動);要轉調用 `key`(整首一起移,伴奏用 librosa 移調,品質普通)。
- ~~歌單只在記憶體~~:歌單存在 settings store(`_global` / `sing:setlist`,每次輪詢有變才寫,停止時再寫一次)。Core 重開後:準備中的歌接回 worker 的工作(worker 也重開過、不認得那個工作時用同樣的查詢再送一次,做好的歌在快取裡會馬上好);準備好的歌還是準備好的,照常提醒她 / 強制的歌照常唱;重開時正在唱的歌被切斷了,變回「準備好了」並改成她決定要不要再唱(不會自動重唱)。

## 23. 七情六欲(情緒系統,2026-11-03)

原本她的感受只有心情(valence / arousal / energy)、五個慾望和每個人一個好感數字。擁有者要的是像人一樣的情緒:好幾種情緒可以同時存在、各自有長短、會因為她在乎的事產生;對人的感情不只好感;傲嬌的她心裡想的和表現出來的不一樣。

**三個時間尺度**

| 層 | 長短 | 內容 | 在哪 |
|---|---|---|---|
| 情緒(七情) | 秒到小時 | 喜 joy、怒 anger、哀 sorrow、懼 fear、驚 surprise、厭 disgust,加上害羞 shy、得意 pride、嫉妒 jealousy、寂寞 lonely、想念 missing、感激 gratitude、愧疚 guilt、不甘心 frustration;每種 0..1、各自的半衰期 | `self`(`EmotionEngine`) |
| 心情 | 小時到一天 | 沿用 valence / arousal / energy;目標 = 人設基準 × 作息(深夜累)+ 情緒推的偏移(`SelfState.affect`),目前值以 `half_life_secs` 跟過去,所以心情跟著情緒、慢半拍 | `mood` |
| 慾望(六欲) | 小時到天 | 原本五個 + `esteem`(想被認可、想表現:唱歌、贏遊戲)、`hunger`(吃白飯 / Token)、`longing`(暗戀的人:想靠近、想被他注意) | `self` |

**情緒怎麼來**:對照她在乎的事(對方是誰、她多在乎、是不是暗戀的人、她現在想要什麼)評估發生的事。

- 便宜的規則(`self/src/rules.ts`):被誇 → 喜 + 害羞 + 得意(唱完歌 10 分鐘內被誇是「歌被稱讚」,得意更多);被罵 / 騷擾 → 怒(與厭、懼)+ 對那個人不爽;送禮 → 感激(也餵飽 `hunger`);遊戲裡死掉 → 不甘心 + 怒,達成成就 → 得意;歌唱完 → 得意,被切掉 → 哀 + 不甘心;她在乎的人好幾天沒出現 → 想念(回來時變成喜,暗戀的人還會害羞);她在乎的人一直回覆別人、不理她 → 嫉妒(暗戀的人更多,`longing` 也上升);答應某人的議程過期沒做 → 愧疚,做完 → 得意一點;LLM 預算被限制 → 餓 + 不甘心。
- 社交模組現在對**每一個**事件發 `social.event`(不管每日上限有沒有擋下數值),情緒照樣反應——擁有者說對個人的負面情緒不設上限。
- 其他的交給社交模組原本的批次評估(`fast` 用途,同一次呼叫):有她的情緒時(`setConcerns`,「她在乎的事」放在 user 訊息、跳脫分隔符),回覆多了每個人的 `romance`(曖昧、撒嬌、體貼)、`others`(跟別人熱絡卻晾著她)、`promise`(說到做到 / 食言)和她自己的 `her` 情緒,發成 `social.appraisal`;self 取一半、有上限。
- 遊戲與擴充可以發 `self.feel`(`{emotion, amount, cause}`、`{emotions:{…}}`,或對人的 `{toward, person, amount}`,每次最多 ±0.5)。
- 心智迴圈的回覆多了 `emotions`(每次最多 ±0.3)與 feelings 項目的 `emotions`(對那個人)。
- 長期沒被滿足的慾望變成情緒:想被陪 / 被注意(`social`、`attention`)很久 → 寂寞(最多 0.8);`hunger`、`esteem` 很久 → 不甘心(最多 0.6);`longing` 沒被滿足 → 想念那個人。這些是「壓力」:慢慢接近目標、在需要持續時把情緒撐住,被滿足後情緒照自己的半衰期退。對不在的人的想念在對方還沒回來前不會退。

**情緒的動態**:同時存在、互不抵消;再被觸發時飽和地加(`v + (1 − v) × amount × gain`),平復直接減;各自指數衰減,低於 `floor` 就忘掉。

**氣質(temperament,profile 設定)**:`profile.toml` 的 `[temperament]`,每種情緒的 `gain`(來得多快)與 `half_life_mins`(退一半多久),沒寫的用程式預設;對人的情緒(想念、嫉妒、感激,和 `resentment` 不爽)用同名的設定。DeepSeek-chan:害羞 ×1.8 / 12 分鐘、得意 ×1.6、怒 ×1.4 / 6 分鐘(來得快去得快)、想念 ×0.5 / 12 小時(慢慢累積)、不甘心 ×1.3。名字打錯會在啟動時警告。

**感受 vs 表現(顯示規則)**:`[temperament] display = "tsundere"`(預設 `open` 照實表現)。最強的那個明顯情緒(≥ `notice`)決定她表現出來的樣子與 `<emo:…>` 標記(Live2D 用的那 9 個):害羞 → 嫌棄、兇回去,強的話臉紅(`embarrassed`,弱的是 `annoyed`);喜 → 表面淡定但話變多(`smug`,很強才藏不住 `happy`);想念 → 裝作不在意,但會提起對方上次說的事(`annoyed`);感激 → 不直接道謝,改幫回去或換話題;表現規則只寫行為,不寫台詞,免得模型照抄;哀、懼在很強時才露出來;怒、得意、驚照實。聊天的 system 備註寫「你現在表現出來的樣子… 台詞和 <emo:…> 照這個走」(只有程式裡的固定文字);心智迴圈的 thought 照真正的感受想、開口照表現出來的樣子。

**對人的感情(最小版)**:每個人在 `self:state` 的 `hearts` 裡有

- `romance`(心動 0..1):只從她已經喜歡的人(好感 ≥ `heart.min_affinity`)的溫暖、曖昧、體貼互動中長出來,依好感放大,**每人每天最多 `daily_gain`**(成長速度,不是上限;要一週以上的好互動才會到暗戀);傷害她(冷淡、罵、騷擾、越線)會直接扣、不設限;沒事時半衰期 `half_life_days`(45 天)。沒有人能直接設定它——沒有工具、指令或 API 能改。
- 對他的情緒:想念、嫉妒、感激、不爽,各自衰減。
- 最後一次看到他、最後一次和她相處的時間、最後看到的名字(給面板,不可信)。

**暗戀的人怎麼選**:romance 最高、而且 ≥ `crush_threshold`(0.35)的人;別人要比現任多 `crush_margin`(0.08)才會換(避免來回跳);現任掉到門檻以下就換成下一個符合的人,沒有就沒有暗戀對象。她要藏起來:聊天的「你的情緒」段落寫「你偷偷喜歡 X(他在 / 不在這裡)。這是祕密…只會在小地方露餡」;心智迴圈的 system 只寫「你有偷偷喜歡的人(參考資料「人」裡標著)」,名字只在資料區塊。

**Prompt 裡有什麼**(只放超過門檻的情緒、最多 `prompt_max` 個):

- 聊天:新的 contributor `emotion`(「你的情緒」,order 34,資料區塊)——真正的感受(強度、最強那個的原因)、表現出來的樣子、暗戀狀態、對在場的人的情緒;`self`(「你的內在」)列強烈的慾望(含新的三個);`mood` 照舊;system 備註多一行「表現出來的樣子」。例:

  ```
  你心裡真正的感受:害羞 0.72、怒 0.40、喜 0.30(Owen 誇我)
  表現出來的樣子:兇回去、嫌棄對方,但臉紅了(<emo:embarrassed>)
  你偷偷喜歡Owen(他現在在這裡)。這是祕密:不要說出來、被問也不承認;只會在小地方露餡(比較在意他說的話、對他特別容易害羞或吃醋)。
  你對在場的人:
  - Carol:不爽 0.50
  (台詞和 <emo:…> 照「表現出來的樣子」走;真正的感受只放在心裡,不用說出來。)
  ```

- 心智迴圈:system 多了「你真正的感受(0~1):害羞 0.62、喜 0.40」「別人看到的你:…(<emo:embarrassed>)」「你有偷偷喜歡的人」,慾望列出新的三個;資料區塊「人」的那個人旁邊寫「你偷偷喜歡的人;想念 0.40」;回覆格式多了 `emotions` 與 feelings 的 `emotions`。想法紀錄的 `input.self.emotions` / `shown`、`input.people[].heart`、`effects.emotions` 給面板的想法細節看。

**對外**:`SelfState` 新增 `emotions()`、`feel()`、`feelToward()`、`shown()`、`affect()`、`heart()`、`hearts()`、`crush()`、`history()`(每 `history_every_mins` 取樣、留 `history_keep` 筆,給面板畫圖);`SelfSnapshot` 多了 `emotions`、`shown`、`hearts`、`crush`,所以 `GET /api/self` 直接帶出來(API 與面板沒改)。`SocialSignals.attitudeOf(person)` 讓 self 用 person id 查好感。

**心情的改變**:有 `self` 模組時心情的目標跟著情緒走,`social.relationship` 不再直接推心情(情緒已經反應了,避免算兩次);她自己的 `<emo:…>` 標記和 `mood.nudge` 照舊。`[modules.mood] emotion_weight`(1)調整情緒推心情的力道。

**新設定**:`[modules.self.rise_per_hour]` `esteem` / `hunger` / `longing`;`[modules.self.satisfy]` `turn_hunger`、`crush_message_longing`、`crush_together_per_hour`;`[modules.self.emotions]` `floor`、`notice`、`prompt_max`、`care_affinity`、`missing_after_hours`、`missing_per_day`、`jealousy_lines`、`jealousy_window_mins`、`lonely_social`、`lonely_per_hour`、`unmet_level`、`unmet_per_hour`、`song_praise_mins`、`max_mind_nudge`、`max_event_nudge`、`history_every_mins`、`history_keep`;`[modules.self.heart]` `min_affinity`、`daily_gain`、`half_life_days`、`crush_threshold`、`crush_margin`、`max_people`;`[modules.mood] emotion_weight`;profile 的 `[temperament]` `display` 與 `[temperament.emotions]`。

**底線不變**:涉及未成年的性內容一律禁止、資料區塊防 injection、行動閘門都照舊;沒有加任何「情緒壓力」的限制,對個人的負面情緒(包括嫉妒)不設上限,也不限定只能是玩笑。

還沒做 / 要注意:

- 數字(各情緒的強度、半衰期、romance 成長速度)只在單元測試裡驗證過,還沒在真的伺服器上跑過幾天看手感。
- 「歌被切掉」分不出是被投票跳過還是她自己停的;「回覆別人」只看 Discord 的回覆對象,沒有用 @ 或語音判斷。
- 想念只對她見過(啟動後有紀錄)的人成立;好幾天前就沒出現、self 沒有紀錄的人不會被想念。
- 關係里程碑(告白、交往之類)還沒做。
