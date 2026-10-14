+++
title = "発表されたGPT-image-2.5 Flareに移行"
description = """
GPT-image-2.5が発表されました。生成速度と品質向上が謳われているので、実際にgpt-image-2.5-flareを使用して画像生成を行い旧モデルと比較してみます。
"""
date = 2026-09-16
[extra]
social_media_card = "ogp.webp"
local_image = "cover.avif"

[taxonomies]
tags = ["Tech", "API"]
+++

<!-- textlint-disable -->

{{< image src="cover.avif" alt="Cover" />}}

<!-- textlint-enable -->

<details>
<summary>Table of Contents</summary>

<!-- toc -->

</details>

このブログの記事上部にあるカバー画像はOpenAIのGPT-image-2を使用してカバー画像を生成していましたが、GPT-image-2.5が発表されたので早速移行してみました。

## GPT-image-2.5の概要

GPT-image-2.5は、性格の異なる2つのモデルとして公開されました。OpenAIはそれぞれを次のように位置づけています。

- `gpt-image-2.5-flare`は「日常的な用途で高品質な画像を生成するための、最も速いモデル」である
- `gpt-image-2.5-sunburst`は「画像の生成と編集における最も高性能なモデル」である

トークン単価はどちらのモデルもGPT-image-2と同じです。

品質指定の段が増えました。これまでは`low` / `medium` / `high`の3段階で、`high`が最上段でした。2.5ではその上に`xhigh`と`max`が加わり、`high`は最上段ではなくなっています。

試験的提供であった透過背景が今回正式な機能として提供されました。`background`に`transparent`を指定してPNGかWebPで受け取ると、背景を抜いた画像が返ります。文字の描画も大きく改善されましたが、正確な位置に置くのは依然として苦手です。

## gpt-image-2.5-flare vs gpt-image-2

移行の前後で何がどう変わるのかを、同じプロンプトで実際に生成して比べました。サイズは1536x864、品質はhighで、両モデルとも条件を揃えました。実際に使用したプロンプトは以下です。

<details>
<summary>プロンプト</summary>

```text
荒れた海の上で対峙するポセイドンとネプチューン。
左に立つポセイドンは青緑の海水をまとい、三叉の銛を振り上げている。
右のネプチューンは白い波頭を鎧のようにまとい、同じく三叉の銛を構える。
二人の間で海面が渦を巻き、波しぶきが高く上がる。
低い位置から見上げる構図、嵐の空、雲間から差す光。
油彩のような重い質感、青と灰色を基調に、波しぶきだけが白く輝く。
文字やロゴは写り込まない。
```

</details>

生成時間は各モデル3回ずつ計測しています。サーバー側の混雑が一方に偏らないよう、GPT-image-2とFlareを1回ずつ交互に実行しました。ジョブを投入してから完了を確認するまでの秒数です。

| モデル              | 1回目 | 2回目 | 3回目 | 中央値 |
| ------------------- | ----: | ----: | ----: | -----: |
| gpt-image-2         | 129.1 | 118.7 | 117.6 |  118.7 |
| gpt-image-2.5-flare |  25.2 |  25.8 |  25.4 |   25.4 |

中央値で4.7倍の差です。3回の振れ幅はGPT-image-2が117.6秒から129.1秒、Flareが25.2秒から25.8秒に収まっていて、たまたま速い1回を引いたわけではありません。2分待つか25秒待つかは、記事を書きながら試行錯誤する場面ではかなり違います。

生成された6枚です。左がgpt-image-2、右がgpt-image-2.5-flareで、上から1回目・2回目・3回目です。この節に掲載しているのは縮小したサムネイルです。元データの可逆WebPは、以下にまとめて置いています。

- [ポセイドンとネプチューンの生成画像（可逆WebP）](https://e.pcloud.link/publink/show?code=kZ9Kq77ZJs6HQphSWUJPRcwIyyiRpJuQAqiy)

<div style="display:grid;gap:1rem;margin:1.5rem 0;
grid-template-columns:repeat(auto-fit,minmax(280px,1fr));">

<figure style="margin:0;text-align:center;">
<img src="poseidon-old-1-thumb.avif"
alt="gpt-image-2が1回目に生成したポセイドンとネプチューン" width="400" height="225" loading="lazy">
<figcaption>1回目 / gpt-image-2</figcaption>
</figure>

<figure style="margin:0;text-align:center;">
<img src="poseidon-flare-1-thumb.avif"
alt="gpt-image-2.5-flareが1回目に生成したポセイドンとネプチューン" width="400" height="225" loading="lazy">
<figcaption>1回目 / gpt-image-2.5-flare</figcaption>
</figure>

<figure style="margin:0;text-align:center;">
<img src="poseidon-old-2-thumb.avif"
alt="gpt-image-2が2回目に生成したポセイドンとネプチューン" width="400" height="225" loading="lazy">
<figcaption>2回目 / gpt-image-2</figcaption>
</figure>

<figure style="margin:0;text-align:center;">
<img src="poseidon-flare-2-thumb.avif"
alt="gpt-image-2.5-flareが2回目に生成したポセイドンとネプチューン" width="400" height="225" loading="lazy">
<figcaption>2回目 / gpt-image-2.5-flare</figcaption>
</figure>

<figure style="margin:0;text-align:center;">
<img src="poseidon-old-3-thumb.avif"
alt="gpt-image-2が3回目に生成したポセイドンとネプチューン" width="400" height="225" loading="lazy">
<figcaption>3回目 / gpt-image-2</figcaption>
</figure>

<figure style="margin:0;text-align:center;">
<img src="poseidon-flare-3-thumb.avif"
alt="gpt-image-2.5-flareが3回目に生成したポセイドンとネプチューン" width="400" height="225" loading="lazy">
<figcaption>3回目 / gpt-image-2.5-flare</figcaption>
</figure>

</div>

総じてFlareのほうが主題をフォーカスし密度が高い構図になっています。コトラストの高く見やすい絵になっています。ただし、gpt-image-2のほうも悪くはなく、広大さと自然なコントラストでこちらが好きと言う方も多いでしょう。

速さは疑いようがなく、何度か引き直して選ぶ使い方であれば1回25秒で試せることの方が効いてきます。

ここまではすべて`high`での生成です。2.5で加わった`max`がどう違うのかを、同じプロンプトで1枚だけ試しました。

<div style="text-align:center;margin:1.5rem 0;">
<figure>
<img src="poseidon-flare-max-thumb.avif"
alt="gpt-image-2.5-flareがmax品質で生成したポセイドンとネプチューン" width="400" height="225" loading="lazy">
<figcaption>quality=max / gpt-image-2.5-flare</figcaption>
</figure>
</div>

所要時間は35.3秒でした。`high`の25秒台から4割ほど伸びています。

サムネではあまりわかりませんが、元のサイズで確認すると明らかに絵が油彩のような質感を再現しています。画像の題材やもっとフォトリアリスティックなトーンであればよりはっきりと質感は上がるかも知れません。この1枚の生成にかかったのは約0.13ドルになります。

## 画像生成に使用しているスクリプト

カバー画像は`scripts/generate-cover.sh`という自前のシェルスクリプトで生成しています。プロンプトと出力先を渡すと、OpenAIに投げてAVIFに変換するところまでやります。全文は以下のとおりです。

<details>
<summary>scripts/generate-cover.sh</summary>

```bash,name=scripts/generate-cover.sh
#!/bin/bash
set -euo pipefail

# Generate cover image using OpenAI gpt-image-2.5 Flare API
# Requires: OPENAI_API_KEY, curl, jq, avifenc
# Note: gpt-image-2.5 can return png, jpeg or webp, but we deliberately
# keep the default PNG. It is the only lossless option among them, and
# feeding a lossless intermediate to avifenc avoids stacking a second
# generation of lossy artifacts on top of the AVIF encode.
#
# AVIF is used for photographic and AI-generated cover images only.
# Diagrams, charts and screenshots must stay lossless WebP:
#   cwebp -lossless -z 9 -exact input.png -o output.webp

SIZE="1536x864"
QUALITY="high"
MODEL="gpt-image-2.5-flare"  # image_generation tool model
HOST_MODEL="gpt-4.1-mini"  # host model that drives the image tool
AVIF_QUALITY="60"

usage() {
  cat <<'USAGE'
Usage: generate-cover.sh -p <prompt> -o <output> [-s size] [-q quality] [-w avif_quality]

Options:
  -p  Image generation prompt (required)
  -o  Output file path, e.g. cover.avif (required)
  -s  Size: 1536x864, 2048x1152, 1024x1024, etc.
      Must be multiples of 16, aspect ratio within 3:1 to 1:3.
      (default: 1536x864 = 16:9)
  -q  Quality: low, medium, high, xhigh, or max (default: high)
      gpt-image-2.5 adds xhigh and max above high. They cost more per
      image, so covers stay at high unless asked otherwise.
  -w  AVIF encoder quality (0-100, default: 60)
      60 is roughly equivalent to the previous cwebp -q 80.

Examples:
  # 16:9 cover image (default)
  ./scripts/generate-cover.sh \
    -p "A futuristic cityscape" \
    -o content/blog/2026/05/my-article/cover.avif

  # Higher-quality AVIF encoding
  ./scripts/generate-cover.sh \
    -p "Abstract pattern" \
    -o output.avif -w 75
USAGE
  exit 1
}

while getopts "p:o:s:q:w:" opt; do
  case $opt in
    p) PROMPT="$OPTARG" ;;
    o) OUTPUT="$OPTARG" ;;
    s) SIZE="$OPTARG" ;;
    q) QUALITY="$OPTARG" ;;
    w) AVIF_QUALITY="$OPTARG" ;;
    *) usage ;;
  esac
done

if [ -z "${PROMPT:-}" ] || [ -z "${OUTPUT:-}" ]; then
  usage
fi

if [ -z "${OPENAI_API_KEY:-}" ]; then
  echo "Error: OPENAI_API_KEY is not set"
  exit 1
fi

echo "Generating image with $MODEL..."
echo "  Size: $SIZE"
echo "  Quality: $QUALITY"
echo "  AVIF quality: $AVIF_QUALITY"
echo "  Prompt: ${PROMPT:0:80}..."

RESP_FILE=$(mktemp -t cover-resp-XXXXXX)
TMP_PNG=$(mktemp -t cover-XXXXXX).png
trap 'rm -f "$RESP_FILE" "$TMP_PNG"' EXIT

# A high-quality render can still take a couple of minutes — longer than the
# ~60s idle timeout that closes a synchronous (or streamed) connection before
# the image is ready. Submit the job in background mode via the Responses API
# and poll for it, so every HTTP request is short-lived and never hits the
# timeout. The image_generation tool drives gpt-image-2.5 Flare; the host model just
# forwards the prompt verbatim.
echo "Submitting background job..."
SUBMIT=$(curl -s --max-time 60 https://api.openai.com/v1/responses \
  -H "Content-Type: application/json" \
  -H "Authorization: Bearer $OPENAI_API_KEY" \
  -d "$(jq -n \
    --arg host "$HOST_MODEL" \
    --arg model "$MODEL" \
    --arg prompt "$PROMPT" \
    --arg size "$SIZE" \
    --arg quality "$QUALITY" \
    '{model: $host, background: true, store: true,
      instructions: "The user message is the exact image prompt. Call the image_generation tool once using that text verbatim as the prompt; do not paraphrase, summarize, translate, or add to it.",
      input: $prompt,
      tools: [{type: "image_generation", model: $model, size: $size, quality: $quality}],
      tool_choice: {type: "image_generation"}}')")

JOB_ID=$(echo "$SUBMIT" | jq -r '.id // empty')
if [ -z "$JOB_ID" ]; then
  echo "Error: $(echo "$SUBMIT" | jq -r '.error.message // "failed to submit job"')"
  exit 1
fi
echo "  Job: $JOB_ID"

echo "Polling for completion (high quality can take a few minutes)..."
STATUS=""
for _ in $(seq 1 120); do
  curl -s --max-time 30 "https://api.openai.com/v1/responses/$JOB_ID" \
    -H "Authorization: Bearer $OPENAI_API_KEY" > "$RESP_FILE"
  STATUS=$(jq -r '.status // "unknown"' "$RESP_FILE")
  case "$STATUS" in
    completed) break ;;
    failed|cancelled|incomplete)
      echo "Error: job $STATUS — $(jq -r '.error.message // .incomplete_details.reason // "no detail"' "$RESP_FILE")"
      exit 1 ;;
  esac
  sleep 5
done

if [ "$STATUS" != "completed" ]; then
  echo "Error: job did not complete (last status: $STATUS)"
  exit 1
fi

B64=$(jq -r '[.output[]? | select(.type=="image_generation_call") | .result][0] // empty' "$RESP_FILE")
if [ -z "$B64" ]; then
  echo "Error: no image in completed response"
  jq -r '.output[]? | select(.type=="message") | .content[]?.text // empty' "$RESP_FILE" | head -c 500
  echo
  exit 1
fi

echo "Decoding base64 image..."
printf '%s' "$B64" | base64 -d > "$TMP_PNG"

echo "Converting to AVIF (quality=$AVIF_QUALITY)..."
avifenc -q "$AVIF_QUALITY" -y 420 -s 6 --ignore-exif --ignore-xmp \
  "$TMP_PNG" "$OUTPUT" > /dev/null

echo "Saved: $OUTPUT ($(du -h "$OUTPUT" | cut -f1))"
```

</details>

今回はパラメータや戻り値に変更はないので、モデル名の修正だけで移行できました。

```diff
-MODEL="gpt-image-2"        # image_generation tool model
+MODEL="gpt-image-2.5-flare"  # image_generation tool model
```

## まとめ

GPT-image-2からGPT-image-2.5 Flareへの移行は、スクリプトのモデル名を1行変えるだけで済みました。パラメータと戻り値は変わらず、トークン単価も据え置きです。

効果がはっきり出たのは速さでした。同じプロンプトと設定で、中央値118.7秒が25.4秒になっています。記事を書きながら何度か引き直す使い方では、この差がそのまま作業の速さになります。

画質は一長一短です。Flareは描写が濃く絵としての見栄えは上です。一方でgpt-image-2は色の指示に忠実で、構図も落ち着いています。速くなったからといって指示への忠実さまで上がったわけではありませんでした。

新しく加わった`max`は35.3秒、1枚あたり約0.13ドルでした。`high`よりも質感は上がりますから、高解像度でここぞという1枚では選ぶ価値があります。

## References

<!-- textlint-disable -->

{% <references> %}

- [OpenAI](https://developers.openai.com/api/docs/guides/image-generation). 「Image generation」
- [OpenAI](https://developers.openai.com/api/docs/pricing). 「Pricing」
- [OpenAI](https://developers.openai.com/api/docs/models/gpt-image-2.5-flare). 「GPT-Image-2.5 Flare」
- [OpenAI](https://developers.openai.com/api/docs/changelog). 「Changelog」

{% </references> %}

<!-- textlint-enable -->
