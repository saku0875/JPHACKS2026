# 技術計画書

企画書（`docs/01-overview.md`）のうち、技術に関わるものをまとめる。
2章の技術スタックはチームで合意済み。

## 1 決まっていること
- LLM の出力は JSON で構造化する（問い・式・変数・単位・正解・解説・出典）。条件変更のスライダーは、この式と変数を使ってアプリ側で再計算する
- LLM に送る画像は囲んだ範囲の切り抜きだけにする（全体の画像は送らない）
- 応答待ちを短くするため、囲んだ直後に LLM の呼び出しを始め、認識結果の確認中も裏で問いを作る（先読み生成）
- 通信はオンライン必須（通信できないときはエラーを表示する）
- アーカイブはクラウド（Firestore）に保存する（写真は切り抜きのみ。画像も Firestore に入れ、Storage は使わない）
- 認証は自作せず Firebase Authentication を使う（パスワードリセットはなし。理由は2.1）
- API の利用回数はハッカソン期間中は制限しない
- MVP ではテストを書かない（フェーズ 3-0 で入れる）

## 2 技術スタック
| 項目 | 決定 | 理由 |
|---|---|---|
| プラットフォーム | Web アプリ（PWA） | URL を開くだけでスマホ実機で動き、ストアへの提出が要らない |
| フロントエンド | Next.js（React + TypeScript） | 画面とサーバー側の処理（LLM の呼び出し）を1つのリポジトリで書ける |
| CSS | Tailwind CSS | スマホ幅への対応が書きやすく、分担しても書き方がそろいやすい。色・影・角丸は `docs/design/tailwind-theme.css` と同じ値を `src/app/globals.css` の `@theme` に置く。フォント（Mochiy Pop One・Zen Maru Gothic）は `next/font/google` で読み込む |
| パッケージ管理 | npm | 全員が追加のインストールなしで使える |
| DB | Firebase（Firestore） | 導入が速く、セキュリティルールで「本人だけ」を制御できる |
| 画像の保存先 | Firebase（Firestore に直接保存） | Storage は従量課金の Blaze プラン（クレジットカード登録）が必須のため。切り抜き画像は数百KBで、1件 1MiB の上限に収まる |
| 認証 | Firebase Authentication | 認証を自作しない。Firestore のルールと連携できる |
| ホスティング | Vercel | Next.js をそのまま公開できる。HTTPS なので、スマホでカメラを試せる（公開のしかたは 10章） |
| LLM | Claude（既定は Opus 5.5 `claude-opus-5-5`。本番は Sonnet 5.5 `claude-sonnet-5-5`・effort low） | 画像入力と JSON の構造化出力に対応。本番は、待ち時間と費用のバランスで Sonnet にしている（9章の実測） |
| 式の計算 | math.js | LLM が出した式を、eval を使わずに安全に計算できる。単位の変換もできる |
| JSON の検証 | Zod | JSON の形を1か所で定義し、型と検証の両方に使える |

- 使うパッケージ（予定）：`next` `react` `tailwindcss` `firebase` `@anthropic-ai/sdk` `mathjs` `zod`。追加するときは AGENTS.md の禁止事項3に従って確認する

### 2.1 認証の方式
- ログイン ID はユーザー名。内部で `<ユーザー名>@<FirebaseのプロジェクトID>.firebaseapp.com` に変換して、Firebase Authentication のメール／パスワード方式で登録する（アプリからメールは送らない）
- ユーザー名にはひらがなも使えるようにする。メールアドレスに使えない文字があるため、ユーザー名を英数字に変換（例：UTF-8 のバイト列を16進数にする）してからメール形式にする
- 変換するとひらがな1文字が6文字になる。メールアドレスの `@` より前は64文字までなので、ユーザー名の長さの上限：【未決】（16進数なら10文字程度）
- メールアドレスを集めないため、パスワードリセットはできない（パスワードを忘れるとアーカイブに戻れない）
- 1つのアカウントの中に複数のプロフィール（子どもごと）を持つ

### 2.2 LLM の呼び出し
- Next.js の Route Handler（サーバー側）から公式 SDK（`@anthropic-ai/sdk`）で呼ぶ。`ANTHROPIC_API_KEY` はサーバー側の環境変数だけに置く
- API はログインした人だけが呼べるようにする。画面から Firebase の ID トークンを送り、サーバー側で、Google の公開鍵を使って署名・期限・発行元・対象を検証する（`src/server/auth.ts`。`firebase-admin` は本番の Vercel で読み込みエラーになったため使わない）（URL を知っている人に使われて課金が膨らむのを防ぐ）
- 出力は構造化出力（`output_config.format`）で JSON の形を指定し、受け取った後に Zod でも検証する
- 断られたとき（`stop_reason: "refusal"`）は別のモデルに切り替えず（`fallbacks` は使わない）、「別のものを囲んでみてね」と表示する。`content` を読む前に必ず `stop_reason` を確認する
- effort（考える深さ）の既定は medium。環境変数 `LLM_EFFORT` で変える（本番は low）。待ち時間はナビゲーターキャラの豆知識（まめちしき）でつなぐ
- 料金と時間の目安：9章の実測（モデルと設定で、1回あたり約 0.3セント〜12セント、3秒〜45秒）

### 2.3 Vercel の制限（Hobby プラン）
- 関数の実行時間：最大 300 秒。60 秒で打ち切る（5.4）ので収まる。ストリーミングは使わない
- リクエスト・レスポンスの大きさ：4.5 MB まで。画像を長辺 1024px に縮小する（5.1）ので収まる
- 関数が動く地域：初期設定はアメリカ（`iad1`）なので、東京（`hnd1`）にしている（`vercel.json`）
- Node.js：22.12 以上（`package.json` の `engines`）。Vercel のプロジェクト設定は 24.x

## 3 全体構成
```
[スマホのブラウザ（Next.js の画面）]
   │  撮影・囲む・切り抜き・縮小・予想・可視化・math.js で再計算
   │
   ├─ Firebase Authentication ……… ログイン（ID トークンを受け取る）
   ├─ Firestore ………………………… プロフィール・アーカイブ・切り抜き画像を読み書き（ルールで本人だけ。匿名公開分は別コレクション）
   │
   └─ Next.js の Route Handler（Vercel・東京）
         │  ID トークンを検証（Google の公開鍵）
         └─ Claude API（API キーはここだけ）
```
- クライアント：撮影、囲む操作と切り抜き、予想の入力、可視化、再計算、アーカイブの表示。Firebase に直接読み書きする
- サーバー：LLM の呼び出しだけ。DB には書かない（保存は画面から行う）

## 4 処理の流れ
```
撮影 → 囲む → 切り抜き・縮小（EXIF も消える）
  → /api/questions に「画像 + 学年 + 出題済みの組み合わせ」を送る（ここから裏で生成）
  → 「これは○○だね？」の確認（違えば修正して作り直す）
  → 問い 3 つ（JSON）→ 検証・math.js で正解を計算 → 選ぶ → 予想
  → 答え合わせ・可視化 → スライダーで再計算 → アーカイブ保存（Firestore）
```
- 自分で問いを書いた場合は、`/api/questions/custom` に「画像 + 学年 + 問いの文」を送り、同じ形の問いを 1 つ受け取る
- 認識結果を修正したときは、修正した名前を付けてもう一度呼ぶ（ユーザーの操作で呼ぶ1回であり、自動リトライではない）

## 5 LLM
### 5.1 入力
- 画像：囲んだ範囲の切り抜きだけ。ブラウザの Canvas で長辺 1024px の JPEG に描き直す（このとき EXIF も消える）。保存用（Firestore）にも同じ画像を使う
- 学年（大まかな目安）
- 学習の進み具合（問いを高度にするため。測り方：【未決】）
- 出題済みの「対象×分野（単元）」の組み合わせ（そのプロフィールのアーカイブから取り出す）
- （修正時）ユーザーが直した認識結果／（自分で書く方式）問いの文

### 5.2 出力（JSON）
| 項目 | 内容 | 型・形式 |
|---|---|---|
| 認識結果 | 「これは○○だね？」に使う名前と、問いが作れるか | `recognition: { label: string, canAsk: boolean }` |
| 問い | 問題文（学年に合わせた漢字・ふりがな） | `questions[].text: string`（ふりがなは `{漢字\|よみ}` の短い記法で書かせる。熟語はことば全体に1つ付ける（`{前提\|ぜんてい}` ○／`{前\|まえ}{提\|てい}` ✕）。文はわかち書き。表示前に、22px 以上は `<ruby>` に、それより小さいときは読みに置きかえる（`src/lib/ruby.ts`）。それ以外のタグはすべて文字として表示する。古い `<ruby>` タグの保存データも読める） |
| 問いのタイプ | 数量推定・比較・「なぜ？」型 | `questions[].type: "estimate" \| "compare" \| "why"` |
| 分類 | 算数・理科・情報／単元／対象 | `subject: "math" \| "science" \| "info"`、`topic: string`、`target: string` |
| 式 | math.js で計算できる式。「なぜ？」型は null | `formula: string \| null`（例：`"length * width / tileArea"`） |
| 変数 | 名前・表示名・値・単位・スライダーの範囲 | `variables: { name, label, value, unit, min, max, step }[]` |
| 単位 | 答えの単位（学年で習ったもの） | `answerUnit: string` |
| 正解 | LLM が考えた値（確認用。表示には使わない） | `llmAnswer: number \| null` |
| 選択肢 | 「なぜ？」型の理由の文章（正解の印つき） | `choices: { text, correct }[] \| null` |
| 解説 | まず一言と、タップで見る計算過程のステップ | `explanation: { short: string, steps: string[] }` |
| 出典 | 根拠データ・前提条件 | `sources: { title: string, url: string \| null, assumption: string }[]` |
| ヒント | 問いの見かた・前提（答えのヒントではない） | `hint: string` |
| 身近なおきかえ | 答えを身近なものにおきかえる（`per`：答え÷value を「unit ぶん」、`times`：答え×value） | `ref: { type: "per" \| "times", label, value, unit } \| null` |
| 条件のといかけ | 条件を変えたくなる一言 | `whatIf: string` |
| 関連・しらべことば | 同じ考えかたの別の問い（0〜2）・もっと調べるときのことば | `related: string[]`、`keyword: string` |

- 1回に出す問いの数：問い生成は 3 つ（3択方式のため）、自分で書いた問いは 1 つ
- 比較型の式と答えの持ち方：【未決】（予想の入力方法は 02-spec 10章で決定済み：4年生までは2択＋何倍かの選択肢、5年生以上は何倍かをスライダー）
- 正解の担保の仕方：
  - 表示する正解は、math.js で式と変数から計算した値を使う（LLM の値は使わない）
  - LLM の値（`llmAnswer`）と計算値が大きくずれる問いは、式が間違っているとみなして出さない（ずれの許容範囲：5%以内）
  - 3 つとも出せないときはエラー表示にする

### 5.3 プロンプト
- いちばん大事なのは意外性（予想が正解から5倍以上ずれる問い、思いこみがひっくり返る問い）。「数えるだけ」「1回のかけ算で出る」「答えが問題文に書いてある」問いは作らせない
- 直感が外れやすい問いの例を与える
- 確率・場合の数の式用に、`harmonic(n)`・`fact(n)`・`comb(n,k)`・`birthday(n)` を使えるようにしてある（`src/lib/calc.ts`）
- 学年に合わせた問い・漢字・単位にする
- むずかしいことば（前提・仮定・根拠 など）を使わず、やさしいことばに言いかえさせる（言いかえの表は `docs/02-spec.md` 2.2）。出力の形の説明（`schema.ts` の describe）にも、むずかしいことばを書かない（AI がそのまま使うため）
- 出題済みの組み合わせと同じ問いを出さない
- 子ども向けとして不適切・危険な内容（火・刃物・電気・薬品・高い所・道路など）を出さないよう制約する
- 計算は LLM にさせず、式と変数を出させる
- 置き場所：LLM まわりは `src/server/llm/` にまとめ、画面側から import できないようにする（`server-only`）
```
src/
  app/api/questions/route.ts         … 問い生成
  app/api/questions/custom/route.ts  … 自分で書いた問い
  server/llm/prompts.ts              … プロンプト（ここだけに書く）
  server/llm/schema.ts               … JSON の形（Zod。検証と型に使う）
  server/llm/client.ts               … Claude の呼び出し
```
- アプリ全体のディレクトリ構成は AGENTS.md を参照

### 5.4 エラー処理
- 形式の崩れ・タイムアウト・API エラー・断られたとき・ID トークンが無効なときに、子どもにも分かるメッセージとやり直すボタンを出す
- タイムアウト：60 秒（囲んでから問いが出るまでの目標も60秒以内。待ち時間はナビゲーターキャラの豆知識でつなぐ）
- 断られたとき（refusal）：別のモデルには切り替えず、「別のものを囲んでみてね」と表示する
- 自動リトライはしない（課金とレート制限のため。SDK の自動リトライも 0 にする）
- 見本の絵（ガチャ・信号・氷のコップ）を使っているときだけ、AI が使えなければ、AI を呼ばずに見本の問い（`src/server/llm/builtin.ts`）に切り替える（ユーザーの操作ではなく、エラー時に1回だけ。画面に「みほんの もんだい」と表示する）
- ログに画像・トークン・API キーを出さない

## 6 データ
| データ | 主な項目 | 保存先 |
|---|---|---|
| アカウント | ユーザー名（メール形式に変換したもの）・パスワード | Firebase Authentication（パスワードはアプリで扱わない） |
| プロフィール | ニックネーム・学年 | Firestore |
| アーカイブ | 問い・式・変数・予想・結果・解説・出典・分類 | Firestore |
| 切り抜き画像 | JPEG（base64） | Firestore（アーカイブと同じドキュメント） |
| 出題済み | 対象×分野（単元） | アーカイブから取り出す（別に保存しない） |
| 収集要素 | スタンプ・称号 | 【未決】（アーカイブから数えるか、別に保存するか）。仮の実装：スタンプはアーカイブから数える。使っている称号はプロフィールの `title` |
| 匿名公開 | 切り抜き画像・問い・称号 | Firestore（公開用の別コレクション。位置情報・ユーザー名は入れない） |

- 構成（いまの実装。型は `src/lib/types.ts`）：
```
Firestore:
  users/{uid}
    └ profiles/{profileId}          id, nickname, grade, title（使っている称号の分類 or null）,
         │                          firstMode（"choices" | "custom"）, createdAt
         └ archives/{archiveId}     id, createdAt, grade, question（5.2 の問い 1 つ分）,
                                    guess（予想）, rating（"pita" | "oshii" | "ohazure"）,
                                    image（切り抜きの data URL）, publicId（公開中なら public の ID）
  public/{postId}                   id, ownerUid, createdAt, image, text, subject, topic, title
                                    （ユーザー名・ニックネーム・位置情報は入れない）
```
- 開発用のローカル版（`NEXT_PUBLIC_BACKEND=local`）は、同じ形をブラウザの localStorage に保存する（`src/lib/backend/local.ts`）
- 画像の大きさ：Firestore の1件は 1MiB まで。base64 にすると元の約1.33倍になるので、JPEG の品質を調整して 1件が 1MiB 未満に収まるようにする
- アクセス制御：Firestore のセキュリティルールで、`users/{uid}` の下は uid が自分のときだけ読み書きできるようにする。`public` はログインした人が読めて、書けるのは投稿した本人だけ（不適切な投稿を消す手段：【未決】）
- 削除：個別・一括で削除できる（Firestore のドキュメントを消す）

## 7 開発環境
- 環境変数：`.env.example` にキー名だけを載せ、実際の値は `.env.local`（git 管理外）に置く。Vercel には管理画面で設定する
  - サーバー側だけ：`ANTHROPIC_API_KEY`、`LLM_MODEL`、`LLM_EFFORT`、`LLM_THINKING`、Firebase のプロジェクト ID（`FIREBASE_PROJECT_ID`。なければ `NEXT_PUBLIC_FIREBASE_PROJECT_ID` を使う）。サービスアカウントの鍵は使わない（2.2）
  - クライアント側（公開されても問題ない値）：Firebase の設定値（`NEXT_PUBLIC_FIREBASE_*`）
  - 開発用：`NEXT_PUBLIC_BACKEND=local`（Firebase なしでブラウザに保存）・`LLM_MODE=mock`（AI を呼ばず見本の問いを返す）。本番（Vercel）では設定しない
- Windows（PowerShell）でも動くようにする
- コマンド（AGENTS.md と同じ）
  | 用途 | コマンド |
  |---|---|
  | 依存関係のインストール | `npm install` |
  | 開発サーバーの起動 | `npm run dev` |
  | lint | `npm run lint` |
  | 型チェック | `npm run typecheck` |
  | 本番ビルド | `npm run build` |
  | テスト | なし（MVP では書かない） |
- スマホ実機で試すときは、本番かプレビューの URL（HTTPS）を使う（カメラは HTTPS か localhost でしか動かないため）

## 8 未決事項
チームで決まるまでは、右の「仮の実装」で動いている。決まったら、この表と `docs/02-spec.md` を書きかえる。

| 項目 | 候補 | 仮の実装 |
|---|---|---|
| 比較型の式と答えの持ち方 | 例：2つの量の式を出させ、「どちらが大きいか」と「何倍か」をアプリで計算する | 式は「A÷B」の1つ。アプリが「どちらが大きいか」と「大きいほうが小さいほうの何倍か」を計算する |
| 学習の進み具合の測り方 | アーカイブの件数・正答の傾向 など | ずかんの件数で レベル1〜5（4件ごとに1つ上がる） |
| ユーザー名の長さの上限 | 16進数に変換するなら10文字程度 | 変換前で 32 バイトまで（ひらがな10文字・英数字32文字） |
| 収集要素の保存方法 | アーカイブから数える／別に保存する | アーカイブから数える。称号に必要な数は5 |
| 匿名公開の詳細と、不適切な投稿を消す手段 | 通報・管理者による削除 など | 投稿した本人だけが消せる（ずかんの詳細の「みんなに みせるのを やめる」）。通報・管理者の削除はない |

## 9 費用と待ち時間（実測）
2026-10-24 に、タイルの床のテスト画像（切り抜き・学年4年生・問い3つ）で、本物の API を1回ずつ測った値。1回の測定なので、ばらつきがある。入力は約6,700トークン（画像とプロンプト）。

| モデル・設定 | 時間 | 出力トークン | 1回あたりの費用 | 問いの質 |
|---|---|---|---|---|
| Haiku 5.5・effort=medium | 28秒 | 4,849 | 約 $0.003 | 答えのヒントが多く、驚きが少ない |
| Haiku 5.5・medium・考える処理オフ（`LLM_THINKING=off`） | 9〜10秒 | 1,166 | 約 $0.001 | ヒントが問題文に入り、驚きがない |
| Sonnet 5.5・effort=low | 13秒 | 1,465 | 約 $0.03 | 写真のタイルを数えた問いが出る。標準的 |
| Sonnet 5.5・effort=medium | 16秒 | 2,409 | 約 $0.04 | 同上 |
| Opus 5.5・effort=medium | 45秒 | 4,691 | 約 $0.12 | 驚きのある問い（点の数の比較など）。いちばん良い |

- 出力トークンには、考える処理の分も含まれる（Opus・Haiku の既定では、これが時間と費用の大半を占める）
- 計算の元の料金は、100万トークンあたり：Haiku 5.5＝$0.10／$0.50、Sonnet 5.5＝$2／$10、Opus 5.5＝$4／$20（入力／出力）
- 1回あたりの時間と費用を測るには、サーバーのログ `[llm]` の `ms`・`inputTokens`・`outputTokens` を見る
- 待ち時間は、いまは認識結果の確認の前に、問いがすべてそろうまで待つ。短くするには、認識結果だけを先に速いモデルで返し、問いは裏で作り続ける案がある（未実装）
- モデルは環境変数 `LLM_MODEL`（`claude-opus-5-5`・`claude-sonnet-5-5`・`claude-haiku-5-5`）、考える深さは `LLM_EFFORT`、考える処理のオフは `LLM_THINKING=off`（Haiku だけ）で変える
- 利用が多いときは API が 429（混雑）を返す。画面には「すこし まってから もういちど ためしてね」と出す（自動で再試行はしない）
- 匿名公開を広げるときは、モデレーション API（`docs/01-overview.md` 11章）と、不適切な投稿を消す手段が必要

## 10 公開（デプロイ）
- 本番の URL：https://fk2601.vercel.app （Vercel のプロジェクト `fk_2601`。チーム `csennkai`）
- いまは Vercel と GitHub が接続されていない。`develop` にマージしても、本番は自動では変わらない
  - 公開するときは、`csennkai` のメンバーのアカウントで、最新の `develop` から `npx vercel --prod` を実行する
  - 手元の `develop` が古いまま実行すると、古い版で本番が上書きされる。先に `git fetch origin` → `git switch --detach origin/develop` で最新にする（実際に一度起きた）
  - まちがえて古い版を出したときは、Vercel の Deployments から正しいデプロイを選んで Promote する（`npx vercel promote <URL>` でもよい）
  - 【未決】Vercel の Settings → Git で GitHub とつなぎ、`develop`（または `main`）へのマージで自動公開するか
- 本番の環境変数（Vercel の Settings → Environment Variables）：`ANTHROPIC_API_KEY`・`LLM_MODEL`・`LLM_EFFORT`・`FIREBASE_PROJECT_ID`・`NEXT_PUBLIC_FIREBASE_*`（4つ）。`NEXT_PUBLIC_BACKEND` と `LLM_MODE` は設定しない
- Firebase の Authentication → 設定 → 承認済みドメインに、本番のドメイン（`fk2601.vercel.app`・`fk2601-csennkai.vercel.app`）を入れてある。ドメインを増やしたときは、ここにも足す
- 公開したあとの確認：本番の `/api/questions` にでたらめなトークンを送ると 401 が返る／Vercel の Logs にエラーが出ていない／ログインして見本の絵から問いが3つ出る

