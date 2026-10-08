# @cartanova/qgrid-ai-sdk

[English](./README.md) · **한국어**

AI SDK v6 custom `LanguageModelV3` provider for [qgrid](https://github.com/cartanova-ai/Qgrid).

**기존 AI SDK 코드 변경 없이, `model` 한 줄만 바꾸면 구독 토큰 풀링(토큰 N개 × concurrent permit) + request log 대시보드를 사용할 수 있습니다.**

```diff
 import { generateText } from "ai";
-import { openai } from "@ai-sdk/openai";
+import { qgrid } from "@cartanova/qgrid-ai-sdk";

 const { text } = await generateText({
-  model: openai("gpt-5.6-luna"),
+  model: qgrid("openai/gpt-5.6-luna"),
   prompt: "서울 날씨 알려줘",
 });
```

이미 다른 provider(google, openai 등)를 직접 사용하고 있다면, **logger 옵션 한 줄**만 추가하면 에이전트의 매 step(generate, tool-call, reasoning)을 qgrid 대시보드에서 확인할 수 있습니다.

```diff
 const { text } = await generateText({
   model: google("gemini-3-flash"),
   prompt: "복잡한 질문",
+  experimental_telemetry: createQgridLogger({ serverUrl: "http://localhost:44900" }),
 });
```

## 설치

```bash
pnpm add @cartanova/qgrid-ai-sdk
```

Peer dependencies: `ai@^6.0.0`, `@ai-sdk/provider@^3.0.0`

## 빠른 시작

```typescript
import { generateText } from "ai";
import { qgrid } from "@cartanova/qgrid-ai-sdk";

const { text } = await generateText({
  model: qgrid("openai/gpt-5.6-luna"),
  prompt: "서울 날씨 알려줘",
});
```

qgrid 서버(`http://localhost:44900`)가 실행 중이어야 합니다.

OpenAI 서버 경로는 private ChatGPT Codex Responses backend를 HTTPS/SSE로 직접 호출합니다. 이 backend는 문서화되지 않아 예고 없이 변경될 수 있으며, qgrid의 mock protocol test는 live provider 검증이 아닙니다.

## 사용법
> 들어가기전에: 모든 클라이언트 사용법은 [AI-SDK](https://ai-sdk.dev/docs/ai-sdk-core)와 동일합니다.

### 텍스트 생성

```typescript
import { generateText } from "ai";
import { qgrid } from "@cartanova/qgrid-ai-sdk";

const { text } = await generateText({
  model: qgrid("openai/gpt-5.6-luna"),
  system: "당신은 학술 논문 요약가입니다.",
  prompt: paperText,
});
```

### 구조화 응답 (Structured Output)
> [AI-SDK structured output guide를 참조하세요](https://ai-sdk.dev/docs/ai-sdk-core/generating-structured-data)

```typescript
import { generateText, Output } from "ai";
import { qgrid } from "@cartanova/qgrid-ai-sdk";
import { z } from "zod";

const { output } = await generateText({
  model: qgrid("openai/gpt-5.6-terra"),
  system: "논문 메타데이터를 추출해주세요.",
  prompt: paperText,
  output: Output.object({
    schema: z.object({
      title: z.string(),
      authors: z.array(z.string()),
      keyFindings: z.array(z.string()),
    }),
  }),
});

console.log(output.title, output.authors);
```

top-level이 `object`인 schema는 서버 structured output으로 전달되어 강제됩니다.
top-level이 `object`가 아니면 (예: array) AI SDK 클라이언트 파싱으로 fallback되며 경고 로그가 출력됩니다.

> **Anthropic 모델 주의:** OpenAI/codex structured output은 디코딩 단계에서 schema를 강제(constrained decoding)하므로 이 부류 실패가 거의 없지만, Claude Code의 `--json-schema`는 `StructuredOutput` tool + 사후 검증 방식이라 복잡한 schema는 모델이 준수하지 못할 수 있습니다. qgrid는 structured streaming에만 `MAX_STRUCTURED_OUTPUT_RETRIES=1`을 주입해 1회 시도로 제한합니다(1 미만 값은 1로 클램프). non-stream `generate`에는 이 override를 주입하지 않고 Claude Code의 기본 retry 예산을 사용합니다. 각 경로의 시도 이후 검증이 실패하면 깨진 JSON 대신 명시적 에러를 반환합니다.

### 스트리밍

```typescript
import { streamText } from "ai";
import { qgrid } from "@cartanova/qgrid-ai-sdk";

const { textStream } = streamText({
  model: qgrid("openai/gpt-5.6-luna"),
  prompt: "TypeScript의 장점을 설명해줘",
});

for await (const chunk of textStream) {
  process.stdout.write(chunk);
}
```

### Tool Calling

```typescript
import { generateText, stepCountIs, tool } from "ai";
import { qgrid } from "@cartanova/qgrid-ai-sdk";
import { z } from "zod";

const { text } = await generateText({
  model: qgrid("openai/gpt-5.6-luna"),
  prompt: "서울 날씨 알려줘",
  tools: {
    getWeather: tool({
      description: "도시의 현재 날씨 조회",
      inputSchema: z.object({ city: z.string() }),
      execute: async ({ city }) => {
        return { temperature: 22, condition: "맑음" };
      },
    }),
  },
  stopWhen: stepCountIs(3),
});
```

tool-call은 qgrid 서버의 structured output emulation으로 동작합니다.
AI SDK가 tool 실행을 관리하고, qgrid는 각 턴의 LLM 호출만 담당합니다.
실행 가능한 tool을 쓸 때는 제한이 있는 `stopWhen`을 지정해야 AI SDK가
tool-call 턴 뒤에도 계속 진행해 모델의 최종 응답을 받습니다.

`tools`와 `Output.object`를 함께 사용할 수도 있습니다.

```typescript
import { generateText, Output, stepCountIs, tool } from "ai";
import { qgrid } from "@cartanova/qgrid-ai-sdk";
import { z } from "zod";

const { output } = await generateText({
  model: qgrid("openai/gpt-5.6-terra"),
  prompt: "서울 날씨를 조회해서 예보를 반환해줘.",
  tools: {
    getWeather: tool({
      description: "도시의 현재 날씨 조회",
      inputSchema: z.object({ city: z.string() }),
      execute: async ({ city }) => ({ city, temperature: 22 }),
    }),
  },
  stopWhen: stepCountIs(3),
  output: Output.object({
    schema: z.object({
      city: z.string(),
      summary: z.string(),
    }),
  }),
});
```

qgrid 2.5.4는 모든 모델 턴에 합성된 action envelope를 강제합니다. tool-call
턴은 AI SDK tool call로 유지되고, 마지막 `answer`는 사용자 schema로 강제된 뒤
`output`으로 반환됩니다. 제한이 있는 `stopWhen`을 지정하지 않으면 AI SDK가
기본 첫 번째 step에서 멈춰 최종 structured output을 만들 수 없습니다. qgrid server
2.5.4와 `@cartanova/qgrid-ai-sdk` 2.5.4가 모두 필요합니다. AI SDK의
`toolChoice`는 현재 전송하거나 강제하지 않으며 tool 선택은 모델이 결정합니다.

### Provider Options

qgrid 전용 옵션은 전부 `providerOptions.qgrid` 네임스페이스로 전달합니다. (`providerOptions.openai`가 아닙니다)
AI SDK는 바깥 `providerOptions`를 범용 JSON record로 타입 선언하므로 qgrid 옵션을 자동 추론하지 못합니다.
따라서 공개 타입 `QgridProviderOptions`를 중첩된 `qgrid` 값에 `satisfies`로 적용하세요. literal 추론을
유지하면서 qgrid 옵션의 오타와 잘못된 값을 컴파일 타임에 잡을 수 있습니다.

```typescript
import { generateText } from "ai";
import { qgrid, type QgridProviderOptions } from "@cartanova/qgrid-ai-sdk";

const { text } = await generateText({
  model: qgrid("openai/gpt-5.6-terra"),
  prompt: "복잡한 문제를 분석해줘",
  providerOptions: {
    qgrid: {
      effort: "high",
      reasoningSummary: "concise",
      verbosity: "medium",
    } satisfies QgridProviderOptions,
  },
});
```

| 옵션 | 값 | 적용 범위 | 설명 |
|---|---|---|---|
| `tokenName` | provider prefix를 포함한 토큰 이름 | 공통 | `anthropic/yds`처럼 활성 토큰 하나를 엄격히 지정. prefix는 model provider와 같아야 하며 빈 값·누락·inactive·quota 초과 시 다른 토큰으로 fallback하지 않음 |
| `logger` | `boolean` | 공통 | qgrid request log 저장 여부. 기본값은 `true`. `false`로 설정해도 client tool 실행과 multi-step 연결은 계속 동작 |
| `sessionKey` | `string` | OpenAI 전용 | 전체 history 재전송 시 불투명 prompt-cache affinity를 파생하는 멀티턴 대화 식별자 ([아래](#멀티턴-prompt-cache-sessionkey) 참조) |
| `effort` | OpenAI: `"low"` \| `"medium"` \| `"high"` \| `"xhigh"` \| `"max"` \| `"ultra"` | OpenAI 전용 (`QgridOpenAIProviderOptions`) | ChatGPT 구독 Codex 경로의 reasoning 깊이. GPT-6 Astra/Sol과 GPT-5.6 Sol/Terra는 `"ultra"`까지, GPT-6 Luna와 GPT-5.6 Luna는 `"max"`까지 지원하며, 모델이 지원하지 않는 값은 서버가 조용히 무시하고 백엔드 기본값을 적용. 공개 OpenAI API의 `"none"`/`"minimal"`은 이 경로에 없음 |
| `effort` | Anthropic: `"low"` \| `"medium"` \| `"high"` \| `"xhigh"` \| `"max"` | Anthropic 전용 (`QgridAnthropicProviderOptions`) | Claude Code `--effort` 허용값. 집합 밖의 값은 서버가 조용히 무시하고 qgrid 기본(`"low"`)을 적용. 모델별 상한(예: Sonnet 4.6은 `"xhigh"` 없음)은 Claude Code가 처리 |
| `verbosity` | `"low"` \| `"medium"` \| `"high"` | OpenAI 전용 | 응답 텍스트의 상세도 |
| `reasoningSummary` | `"auto"` \| `"concise"` \| `"detailed"` \| `"none"` | OpenAI 전용 | 추론 요약 출력 방식 |
| `serviceTier` | `string` | OpenAI 전용 | OpenAI/codex service tier |
| `timeoutMs` | 양의 정수, 최대 `1_800_000` | Anthropic 전용 | 서버의 Claude Code 프로세스 제한시간(ms). SDK의 non-stream HTTP 제한은 이 값보다 60초 길게 설정. 기본값은 240초 |
| `imageGeneration` | `boolean` | OpenAI 전용, non-stream | codex 내장 `image_generation` tool 활성화 ([아래](#image-generation) 참조) |
| `imageGenerationOptions` | `{ quality?, size?, background? }` | OpenAI 전용 | 이미지 생성 옵션. `background: "transparent"`는 전용 경로 사용. 실제 크기·품질은 응답 metadata 확인 ([아래](#image-generation)). |
| `fallbackModels` | `string[]` | 예약 | 향후 qgrid 서버 fallback routing용 예약 필드. 현재 동작하지 않으며 Claude Code의 Fable refusal fallback과 무관 |

```typescript
await generateText({
  model: qgrid("anthropic/claude-fable-5"),
  prompt,
  providerOptions: {
    qgrid: { tokenName: "anthropic/yds" } satisfies QgridProviderOptions,
  },
});
```

`tokenName`은 `streamText`에서도 같은 방식으로 동작합니다.

AI SDK 최상위 `timeout`은 전체 클라이언트 제한시간이며 custom provider 실행 전에
`AbortSignal`로 변환됩니다. 따라서 그 숫자 자체는 qgrid에 전달되지 않습니다. qgrid 서버의
Claude Code 프로세스 제한시간을 바꾸려면 `providerOptions.qgrid.timeoutMs`를 사용하세요.
Anthropic `generateText` 요청에는 전역 설정을 바꾸지 않는 요청별 Undici dispatcher가 붙고,
`headersTimeout`과 `bodyTimeout`은 `timeoutMs + 60_000`으로 설정됩니다. 예를 들어 서버 제한이
600초면 HTTP 전송 예산은 660초입니다. 이 여유 시간 덕분에 클라이언트 전송 계층보다 서버의
명시적 timeout 응답이 먼저 도착할 수 있습니다. 클라이언트 취소 또는 비스트리밍 HTTP 연결
종료도 서버의 provider 실행을 중단합니다.

### 멀티턴 prompt cache (sessionKey)

멀티턴 대화에서 `sessionKey`로 호출자의 도메인 ID(게임 세션 ID, 채팅방 ID 등)를 넘기면 SDK가 model 범위의 불투명 affinity key를 파생합니다. Qgrid는 이를 `prompt_cache_key`로 보내고 매 요청 전체 대화 history를 재전송합니다. Provider thread나 process session은 보관하지 않습니다.

```typescript
const { text } = await generateText({
  model: qgrid("openai/gpt-5.6-luna"),
  prompt: nextTurnPrompt,
  providerOptions: { qgrid: { sessionKey: "game-session-123" } },
});
```

- SDK 내부 affinity coordinate entry는 idle 10분 후 만료됩니다. 동일 affinity key 파생은 이 entry에 의존하지 않습니다.
- `anthropic/*` 모델에서는 무시됩니다. Claude Code는 자체 prefix-cache 동작을 사용합니다.

### Image Generation

OpenAI/codex 경로 전용, `generateText` 전용입니다. 요청별로 이미지 생성을 활성화하고 결과를 AI SDK `files`로 받습니다. 투명 배경은 Codex 전용 Images 경로를, 그 외에는 내장 `image_generation` 도구를 사용합니다.

```typescript
const result = await generateText({
  model: qgrid("openai/gpt-5.6-terra"),
  prompt: "우주를 나는 고래 일러스트",
  providerOptions: {
    qgrid: {
      imageGeneration: true,
      imageGenerationOptions: { quality: "medium", size: "1536x1024" },
    },
  },
});

const image = result.files[0]; // mediaType: "image/png", base64
```

레퍼런스 이미지는 일반 AI SDK multimodal message part로 전달할 수 있습니다:

```typescript
const result = await generateText({
  model: qgrid("openai/gpt-5.6-terra"),
  messages: [
    {
      role: "user",
      content: [
        { type: "text", text: "이 이미지를 스타일 레퍼런스로 사용해서 포스터를 만들어줘" },
        { type: "file", mediaType: "image/png", data: referenceImageBase64 },
      ],
    },
  ],
  providerOptions: { qgrid: { imageGeneration: true } },
});
```

- `streamText`에서는 거부됩니다 (non-stream 전용).
- 이미지 생성 요청은 provider 대화 상태를 보관하지 않고 전체 input을 직접 전송합니다.
- 레퍼런스 이미지는 JSON data URL로 전송됩니다. 큰 사진은 압축하거나 리사이즈해서 전달하세요. 과도하게 큰 base64 입력은 SDK가 거부하며, 사진에는 WebP/JPEG를 권장합니다.
- 이미지 비용은 `gpt-image-2` 공개 단가표 기반 **추정치**로 request log의 `image_cost_usd`에 별도 기록됩니다 (codex가 정확한 이미지 tool 사용량을 노출하지 않음).
- `imageGenerationOptions.background`는 `"auto" | "opaque" | "transparent"`를 지원합니다. `"transparent"` 요청만 기존 ChatGPT 구독 토큰으로 Codex 전용 `images/generations` 또는 `images/edits` 경로를 사용합니다. 나머지는 기존 Responses 도구 경로를 유지합니다. 투명 경로는 텍스트 모델 없이 `gpt-image-2`를 직접 실행하며, tools·structured output은 지원하지 않습니다. 레퍼런스는 최대 5장입니다. 불투명·완전 빈 이미지·손상된 PNG는 오류로 처리하고, 별도 배경 제거로 대체하지 않습니다.
- 실제 출력 정보는 `result.providerMetadata.qgrid.imageGeneration` 배열에 있습니다(`contentIndex`, `model`, `route`, `size`, `quality`, `background`, 이미지 `usage`). `result.content` 파일 파트에도 metadata가 있지만 `result.files[]`에는 없습니다. 실호출에서 `1024x1024`/`high` 요청이 `1254x1254`/`medium`으로 반환됐으므로, 요청값을 최종 출력값으로 간주하면 안 됩니다. qgrid는 실제 PNG 크기를 보고하며 리사이즈하지 않습니다.
- 투명 경로는 텍스트 모델을 실행하지 않아 일반 토큰 usage·비용이 0입니다. 이미지 usage는 별도로 보존하고, `image_cost_usd`는 보고된 토큰과 공개 API 단가로 추정합니다. 알려진 text/image input은 구분하고 불명확한 input은 보수적으로 계산하며, 캐시 할인은 반영하지 않습니다. 구독 청구액을 뜻하지 않습니다.
- 명시한 이미지 옵션은 이미지 도구 로그의 `requestedOptions`에 기록하며 `pricingAssumption`과 구분합니다. 옵션 생략 시 비용 추정에 쓰는 `1536x1024`/`medium`은 실제 출력 크기·품질의 기본값을 보장하지 않습니다.

투명 생성은 위 `imageGenerationOptions`에 `background: "transparent"`를 추가하고, 프롬프트에도 피사체 밖의 투명 배경을 명시하세요. 크로마키·배경색 지시는 제거해야 합니다. 이 기능이 포함된 서버와 SDK가 모두 필요하며, 저장 시 PNG 알파를 유지하세요. 정확한 최종 크기는 소비 앱의 명시적인 crop/resize 정책으로 처리합니다.

## Telemetry Logger

서버와 AI SDK 2.10.0부터 qgrid provider의 `generateText` 결과에서는 `result.providerMetadata?.qgrid?.requestLogId`로 요청 로그 ID를 확인할 수 있습니다. `streamText`는 스트림 소비 후 `(await result.providerMetadata)?.qgrid?.requestLogId`로 확인합니다. 직접 API를 호출하면 `query` 응답과 스트림 `done` 이벤트의 최상위 `requestLogId`에 같은 값이 담깁니다. `logger: false` 또는 구버전 서버에서는 이 필드가 없으며, 툴 호출 후속 단계는 같은 요청 로그 ID를 공유합니다. 이 ID는 후속 요청 연결 상태가 아니며, 아래 telemetry logger를 쓰는 외부 provider에는 이 metadata가 추가되지 않습니다.

qgrid provider가 아닌 모델(google, openai 직접 호출)에서도 같은 request log 대시보드를 사용하려면 `createQgridLogger`를 `experimental_telemetry`에 넣으면 됩니다.

```typescript
import { generateText } from "ai";
import { google } from "@ai-sdk/google";
import { createQgridLogger } from "@cartanova/qgrid-ai-sdk";

const { text } = await generateText({
  model: google("gemini-3-flash"),
  prompt: "안녕하세요",
  experimental_telemetry: createQgridLogger({
    serverUrl: "http://localhost:44900",
  }),
});
```

병렬 호출, run 분리, telemetry 활성화 등은 자동 처리됩니다.

### Logger 설정

```typescript
createQgridLogger({
  serverUrl: string;           // qgrid 서버 주소 (필수)
  projectName?: string;        // request_logs.project_name (기본: QGRID_PROJECT_NAME 환경변수)
  tokenName?: string;          // request_logs.token_name (기본: "external")
  staleRunTimeoutMs?: number;  // watchdog timeout (기본: 30분 또는 AI SDK timeout + 여유시간, 0으로 비활성화)
  onLogError?: (error: Error) => void;  // 로깅 실패 콜백
});
```

모든 설정은 optional (serverUrl 제외). 기본값이 있으므로 `serverUrl`만 넣으면 동작합니다.

logger는 generate/tool-call step과 usage를 기록하지만, 장착된 tool 정의(name/description/inputSchema)는
기록하지 않습니다 — 대시보드의 "Tools" 섹션은 qgrid provider를 경유한 요청에만 표시됩니다.

특정 generation을 request log 저장에서 제외하려면 `providerOptions.qgrid.logger`를
`false`로 설정하세요. qgrid provider 호출과 `createQgridLogger`가 관찰하는 외부 provider
호출에 모두 적용되며, tool 실행과 multi-step 연결은 계속 정상 동작합니다.

```typescript
import { type QgridProviderOptions } from "@cartanova/qgrid-ai-sdk";

const { text } = await generateText({
  model: google("gemini-3-flash"),
  prompt: "이 요청은 저장하지 마",
  providerOptions: {
    qgrid: { logger: false } satisfies QgridProviderOptions,
  },
  experimental_telemetry: createQgridLogger({ serverUrl: "http://localhost:44900" }),
});
```

외부 provider request log의 모델 이름은 `provider/modelId` 형식으로 저장됩니다. provider가
AI SDK response metadata로 실제 serving 모델을 다르게 보고하면 step과 final log에는
관찰된 serving 모델을 저장하고 requested model은 별도로 유지합니다. AI SDK runtime의
`response.modelId`는 변경하지 않습니다. `openai.responses`는 `openai`로,
`anthropic.messages`는 `anthropic`으로 적재하는 등 AI SDK adapter suffix는 base provider로 정규화합니다.

### qgrid provider와 함께 사용

`qgrid()` provider는 자체 lifecycle이 있으므로 logger가 자동으로 suppress됩니다. 같은 코드에서 qgrid provider와 다른 provider를 섞어 써도 이중 기록되지 않습니다.

## 지원 모델

```typescript
type QgridSupportedModel =
  // OpenAI (direct private Codex Responses backend)
  | "openai/gpt-6-astra"
  | "openai/gpt-6.1-sol"
  | "openai/gpt-6-sol"
  | "openai/gpt-6-luna"
  | "openai/gpt-5.6-sol"
  | "openai/gpt-5.6-terra"
  | "openai/gpt-5.6-luna"
  | "openai/gpt-5.5"
  | "openai/gpt-5.4"
  | "openai/gpt-5.2"
  | "openai/gpt-5.4-mini"
  | "openai/gpt-5.3-codex"
  | "openai/gpt-5.3-codex-spark"
  // Anthropic
  | "anthropic/claude-fable-5-1"
  | "anthropic/claude-fable-5"
  | "anthropic/claude-haiku-4-5"
  | "anthropic/claude-sonnet-4"
  | "anthropic/claude-sonnet-4-5"
  | "anthropic/claude-sonnet-4-6"
  | "anthropic/claude-sonnet-4-7"
  | "anthropic/claude-sonnet-5"
  | "anthropic/claude-opus-4"
  | "anthropic/claude-opus-4-1"
  | "anthropic/claude-opus-4-5"
  | "anthropic/claude-opus-4-6"
  | "anthropic/claude-opus-4-7"
  | "anthropic/claude-opus-4-8"
  | "anthropic/claude-opus-5"
  | "anthropic/claude-opus-5-5"
  | "anthropic/claude-sonnet-5-5"
  | "anthropic/claude-haiku-5-5"
```

`openai/gpt-5.4`, `openai/gpt-5.4-mini`, `openai/gpt-5.2`, `openai/gpt-5.3-codex`는 하위 호환을 위해 타입에 남아 있지만, qgrid가 사용하는 ChatGPT 구독 Codex 경로에서는 더 이상 제공되지 않습니다. `gpt-5.4`와 `gpt-5.4-mini`는 2026-08-31에 retire되었고(대체: `openai/gpt-5.6-terra`, `openai/gpt-5.6-luna`), `gpt-5.2`와 `gpt-5.3-codex`는 그보다 먼저 해당 경로에서 제거되었습니다. 이 id로 요청하면 백엔드에서 실패합니다.

### GPT-6 사양

| 모델 | Context (Codex 카탈로그) | 최대 출력 (공개 API) | 1M tokens당 input / cached input / cache write / output |
|---|---:|---:|---:|
| `openai/gpt-6-astra` | 272K | 128K | $10 / $1 / $12.50 / $50 |
| `openai/gpt-6.1-sol` | 272K | 128K | $2 / $0.10 / $2.50 / $10 |
| `openai/gpt-6-sol` | 272K | 128K | $2 / $0.20 / $2.50 / $10 |
| `openai/gpt-6-luna` | 272K | 128K | $0.10 / $0.01 / $0.125 / $0.50 |

2026-09-23에 조회한 Codex 카탈로그는 Astra, Sol, Luna 모두 272K context window를 제공합니다. Astra와 Sol은 `ultra`까지, Luna는 `max`까지 reasoning effort를 지원합니다. 백엔드 기본값은 세 모델 모두 `medium`이며, qgrid SDK의 기본값은 기존대로 `low`이니 다른 깊이가 필요하면 effort를 명시하세요. [Astra](https://developers.openai.com/api/docs/models/gpt-6-astra), [Sol](https://developers.openai.com/api/docs/models/gpt-6-sol), [Luna](https://developers.openai.com/api/docs/models/gpt-6-luna)의 공개 API 문서는 별도로 1.05M context, 최대 입력 922K, 최대 출력 128K와 `max`까지의 effort를 명시하며 `ultra`는 포함하지 않습니다. 이 공개 API 한도를 구독 경로의 한도로 간주하지 않습니다. Qgrid 비용 추정에는 [표준 API 단가](https://developers.openai.com/api/docs/pricing)를 사용합니다. Cache write는 uncached input 단가의 1.25x이며, 입력이 272K tokens를 넘으면 요청 전체에 input/cache 2x, output 1.5x 단가가 적용됩니다. GPT-6 Sol과 Luna(2026-09-22 출시)는 GPT-5.6 Sol/Luna의 절반 단가이며, 기존 모델 단가는 2026-09-23에 재확인했고 변동이 없습니다. [GPT-6.1 Sol](https://developers.openai.com/api/docs/models/gpt-6.1-sol)(2026-09-29 출시)은 GPT-6 Sol과 단가가 같고 cached input만 $0.10입니다. 2026-09-30에 조회한 Codex 카탈로그는 272K context window, `ultra`까지의 effort, 백엔드 기본값 `low`를 명시하며, 같은 날 qgrid 요청 형태로 라이브 생성에 성공했습니다. `openai/gpt-5.5`는 2026-10-14에 Codex/ChatGPT 경로에서 은퇴하므로 `openai/gpt-6.1-sol` 또는 `openai/gpt-6-luna`로 옮기세요.

### GPT-5.6 사양

| 모델 | Context (Codex 카탈로그) | 최대 출력 (공개 API) | 1M tokens당 input / cached input / cache write / output |
|---|---:|---:|---:|
| `openai/gpt-5.6-sol` | 272K | 128K | $4 / $0.40 / $5 / $20 |
| `openai/gpt-5.6-terra` | 272K | 128K | $2 / $0.20 / $2.50 / $12 |
| `openai/gpt-5.6-luna` | 272K | 128K | $0.20 / $0.02 / $0.25 / $1.20 |

2026-09-07에 조회한 Codex 카탈로그는 세 모델 모두 272K context window를 제공합니다. Sol과 Terra는 `ultra`까지, Luna는 `max`까지 reasoning effort를 지원합니다. 백엔드 기본값은 Sol이 `low`, Terra와 Luna가 `medium`이며, qgrid SDK의 기본값은 세 모델 모두 `low`입니다. [Sol](https://developers.openai.com/api/docs/models/gpt-5.6-sol), [Terra](https://developers.openai.com/api/docs/models/gpt-5.6-terra), [Luna](https://developers.openai.com/api/docs/models/gpt-5.6-luna)의 공개 API 문서는 별도로 1.05M context, 최대 입력 922K, 최대 출력 128K를 명시합니다. 이 공개 API 한도를 구독 경로의 한도로 간주하지 않습니다.

Qgrid 비용 추정에는 [표준 API 단가](https://developers.openai.com/api/docs/pricing)를 사용합니다. Sol의 표에 명시된 프로모션 가격은 최소 2026-11-21까지 제공되며, 이후 단가는 가정하지 않습니다. 입력이 272K tokens를 넘으면 요청 전체에 input/cache 2x, output 1.5x 단가가 적용됩니다. Cache write는 uncached input 단가의 1.25x입니다.

`anthropic/claude-fable-5`는 1M context와 128K 최대 출력을 지원합니다. 1M tokens당 표준 단가는 input $10, cache read $1, 5분 cache write $12.50, 1시간 cache write $20, output $50입니다. qgrid는 Claude 응답의 5분/1시간 cache creation breakdown을 보존해 TTL별 단가를 각각 적용하며, breakdown이 없는 구버전 응답에서만 Claude Code가 subscription OAuth 경로에 자동 적용하는 1시간 TTL 단가로 fallback합니다. Fable은 adaptive thinking이 항상 켜져 있어야 하므로 qgrid는 이 모델의 adaptive thinking을 보존합니다.

`anthropic/claude-fable-5-1`(2026-09-01 출시)은 Fable 5와 같은 1M context, 128K 최대 출력, 항상 켜진 adaptive thinking, input $10 / output $50 단가를 공유합니다. cache read만 Fable 5의 $1 대신 1M tokens당 $0.25(input의 0.025x)로 과금되며, cache write는 $12.50(5분)/$20(1시간)으로 같습니다. Fable 5.1의 API 수준 파괴적 변경(forced `tool_choice` 거부, 모델에 귀속된 thinking 블록)은 qgrid에 영향을 주지 않습니다. qgrid는 도구를 끈 Claude Code를 fresh 프로세스로 실행하고 히스토리를 텍스트로 평탄화해 전달하기 때문입니다.

`anthropic/claude-opus-5`는 기본 1M context와 128K 최대 출력을 지원합니다. 1M tokens당 단가는 input $5, cache read $0.50, 5분 cache write $6.25, 1시간 cache write $10, output $25입니다. qgrid는 Opus 5의 기본 adaptive thinking 동작을 유지하고 `effort`로 추론 깊이를 조절합니다. 따라서 `xhigh` 또는 `max` effort에서 허용되지 않는 `thinking: disabled` 조합도 만들지 않습니다.

`anthropic/claude-opus-5-5`(2026-09-22 출시)는 1M context와 128K 최대 출력을 지원합니다. 1M tokens당 단가는 input $4, cache read $0.20(input의 0.05x), 5분 cache write $5, 1시간 cache write $8, output $20입니다. adaptive thinking이 항상 켜져 있고 끌 수 없으므로 qgrid는 Fable과 같이 이를 보존하고 `effort`로 추론 깊이를 조절합니다. Opus 5.5의 API 수준 파괴적 변경(forced `tool_choice` 거부, 모델에 귀속된 thinking 블록)은 Fable 5.1과 같은 이유로 qgrid에 영향을 주지 않습니다. Opus 5 단가는 변동이 없습니다.

`anthropic/claude-sonnet-5-5`(2026-09-28 출시)는 1M context와 128K 최대 출력을 지원하며 Sonnet 5와 같은 기본 단가입니다. 1M tokens당 input $2, 5분 cache write $2.50, 1시간 cache write $4, output $10이고, cache read는 2026-10-07에 $0.20에서 절반으로 인하되어 Opus 5.5와 같은 0.05x인 $0.10입니다. qgrid는 요청 시점 단가로 비용을 기록하므로 그 이전 로그는 $0.20 추정치를 유지합니다. thinking 비활성화를 거부하므로 qgrid는 Opus 5.5와 같이 adaptive thinking을 유지하고 `effort`로 추론 깊이를 조절합니다.

`anthropic/claude-haiku-5-5`(2026-10-07 출시)는 1M context와 128K 최대 출력을 지원하며, 현행 Claude 모델 중 유일하게 프롬프트 길이별 단가를 씁니다. 100K 토큰 이하 프롬프트는 1M tokens당 input $0.10, cache read $0.01, 5분 cache write $0.125, 1시간 cache write $0.20, output $0.50이고, 프롬프트가 100K 토큰을 넘으면 모든 단가가 5배($0.50 / $0.05 / $0.625 / $1 / $2.50)로 요청 전체에 적용됩니다. qgrid는 GPT-6에 쓰는 요청 전체 long-context 규칙으로 이를 계산합니다. adaptive thinking이 기본으로 켜져 있고 API 기본 effort는 `medium`이며, API는 `xhigh`/`max`에서 thinking 비활성화를 거부하고 Claude Code 2.1.293 카탈로그도 `rejects_disabled_thinking`으로 표시하므로 qgrid는 adaptive thinking을 유지하고 `effort`(SDK 기본 `low`)로 추론 깊이를 조절합니다. Haiku 5.5는 Claude 4.7+ 토크나이저를 쓰므로 같은 텍스트가 Haiku 4.5보다 약 30% 더 많은 토큰으로 계산됩니다.

Claude Code는 Fable의 safety refusal을 다른 Opus 모델로 자동 재시도할 수 있습니다. 현재 CLI는 refusal 카테고리에 따라 Opus 5 또는 Opus 4.8을 고릅니다. 이 경우 AI SDK 응답의 `response.modelId`와 `providerMetadata.qgrid.model`은 실제 serving 모델인 Opus를 가리킵니다. `providerMetadata.qgrid.requestedModel`은 Fable로 유지되고, `providerMetadata.qgrid.modelFallbacks`에 refusal fallback 이력이 담깁니다. 같은 metadata에서 `costSource`와 5분/1시간 cache-write 토큰 분해도 확인할 수 있습니다.

`openai/gpt-5.3-codex-spark`는 아직 token 단가가 확정·공개되지 않은 research preview입니다. 따라서 qgrid는 generic fallback 추정치를 보고하며, 이를 공식 단가로 취급하지 않습니다.

## 설정

```typescript
qgrid(modelId, {
  serverUrl?: string;      // qgrid 서버 주소 (기본: QGRID_URL 환경변수 또는 http://localhost:44900)
  defaultEffort?: ...;     // effort 기본값 (기본: "low"). 모델 ID prefix에 따라 provider 어휘로 타입 검사
  projectName?: string;    // request_logs.project_name (기본: QGRID_PROJECT_NAME 환경변수)
});
```

`qgrid()`는 모델 ID prefix로 오버로드되어 `openai/*`에는 `QgridOpenAIEffort`, `anthropic/*`에는 `QgridAnthropicEffort`가 `defaultEffort` 타입으로 적용됩니다. `providerOptions.qgrid`는 AI SDK 타입이 모델과 연결해 주지 않으므로 `QgridProviderOptions`는 `QgridOpenAIProviderOptions | QgridAnthropicProviderOptions`의 union이며, provider를 아는 호출자는 provider별 타입에 `satisfies`를 쓰는 편이 정확합니다.

여러 프로젝트/워크플로우가 한 qgrid 서버를 공유한다면 `QGRID_PROJECT_NAME`을 설정하세요. 대시보드에서 request log를 프로젝트별로 필터링하고 토큰/비용/캐시 지표를 워크로드별로 비교할 수 있습니다. config `projectName`은 특정 호출자만 다른 이름을 써야 할 때의 override 용도입니다.

## 환경변수

| 변수 | 설명 | 기본값 |
|---|---|---|
| `QGRID_URL` | qgrid 서버 주소 | `http://localhost:44900` |
| `QGRID_PROJECT_NAME` | request log 프로젝트 이름 (provider/logger 공통) | (없음) |

## 주의사항

- `temperature`, `maxOutputTokens` 등 sampling 파라미터는 OpenAI private Codex 경로와 Anthropic Claude Code 경로가 qgrid를 통해 받지 않으므로 무시됩니다.
- Structured output은 top-level `object` schema만 서버에서 강제됩니다. top-level `array`는 클라이언트 파싱 fallback.
- `tools`와 `Output.object`를 함께 사용하려면 qgrid server와 AI SDK가 모두 2.5.4 이상이어야 합니다.
- AI SDK/Zod가 Draft-7 `items: [...]`로 만드는 위치 기반 tuple은 지원되는
  positive schema 위치에서 OpenAI 호출 전에 정규화되고 위치별 제약이
  강제됩니다. tuple tail이 생략되면 고정 길이로 해석하며,
  `additionalItems: true`로 명시한 무제한 tail은 HTTP 400으로 거부합니다.
  negative, conditional 등 안전하게 정규화할 수 없는 위치의 tuple도 의미가
  바뀌는 변환 대신 HTTP 400으로 거부합니다. definition은 전역 정규화되므로
  해당 위치에서 참조하는 경우도 같은 이유로 거부합니다. Anthropic 위치 기반
  tuple schema는 Claude Code가 위치 의미를 보존할 수 없어 HTTP 400으로
  거부됩니다. tuple node는 `type: "array"`를 명시해야 하며 nullable tuple은
  array/null `anyOf`로 표현합니다.
- structured schema에서는 문서 root 또는 `$defs`/`definitions` entry root만
  연속으로 가리키는 로컬 root-relative JSON Pointer `$ref`를 허용합니다.
  property, tuple 내부, conditional, literal 값을 가리키는 ref는 정규화 중
  target이 이동하거나 다시 작성될 수 있어 HTTP 400으로 거부합니다. resource
  ID, anchor, 외부 ref, dynamic ref, recursive ref도 허용하지 않습니다.
- output/tool schema serialization, tool 이름, 설명, JSON escaping,
  composition framing은 합산 UTF-8 512 KiB 전처리 한도를 공유합니다.
  schema 값에는 별도로 합산 20,000 node와 schema별 최대 깊이 128 한도가
  적용됩니다. 잘못되거나 한도를 넘는 입력은 provider 실행 전에 HTTP 400으로
  실패합니다.
- Anthropic 경로에서는 최종 합성 schema가 Claude Code 전송의 안전한 단일 argv
  한도인 64 KiB도 넘지 않아야 합니다.
- AI SDK의 `toolChoice`는 현재 qgrid에서 지원하지 않습니다.

## 요구사항

- Node.js >= 20
- AI SDK v6 (`ai@^6.0.0`)
- 실행 중인 qgrid 서버
