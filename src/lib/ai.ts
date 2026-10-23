/**
 * Motor de Inferência IA (YOLOv8 ONNX + Calibração Anatômica de Garupa) (`src/lib/ai.ts`).
 *
 * Responsabilidades:
 * 1. **Detecção Primária (YOLOv8 ONNX `identifier.onnx`)**:
 *    Executa o grafo neural treinado especificamente na classe `Back` (traseira bovina).
 * 2. **Calibração de Confiança (`calibrateYoloScore`)**:
 *    Converte a confiança bruta da rede neural (0.0 a 1.0) para a métrica zootécnica de
 *    qualidade do enquadramento (0% a 100%):
 *    - Ruído de fundo ou objetos não-bovinos (`rawConf < 0.02`): 0% a 5% (baixa confiança).
 *    - Detecção fraca / animal distante (`0.02 <= rawConf < 0.15`): 5% a 35%.
 *    - Detecção moderada de garupa (`0.15 <= rawConf < 0.45`): 35% a 70%.
 *    - Detecção excelente com pinças visíveis (`rawConf >= 0.45`): 70% a 98%.
 * 3. **Fallback Óptico Equilibrado**:
 *    Quando o runtime ONNX não puder ser executado, avalia centralidade, exposição e
 *    foco sem favorecer ruídos caóticos de fundo.
 */
import sharp from "sharp";
import path from "path";
import fs from "fs";

export interface RearDetectionResult {
  score: number;
  rawConfidence: number;
  lowQuality: boolean;
  source: "yolo-onnx" | "vision-analysis";
  box?: {
    cx: number;
    cy: number;
    w: number;
    h: number;
  };
  feedback: string;
}

// eslint-disable-next-line @typescript-eslint/no-explicit-any
let session: any | null = null;
// eslint-disable-next-line @typescript-eslint/no-explicit-any
let ortModule: any | null = null;
let sessionLoadAttempted = false;

/**
 * Localiza o arquivo `identifier.onnx` em múltiplos caminhos possíveis no filesystem
 * (raiz do projeto, pasta public/ e caminhos do bundler Vercel Serverless).
 */
function resolveModelPath(): string | null {
  const candidates = [
    path.join(process.cwd(), "identifier.onnx"),
    path.join(process.cwd(), "public", "identifier.onnx"),
    path.resolve(__dirname, "identifier.onnx"),
    path.resolve(__dirname, "../identifier.onnx"),
    path.resolve(__dirname, "../../identifier.onnx"),
    path.resolve(__dirname, "../../../identifier.onnx"),
    path.resolve(__dirname, "../public/identifier.onnx"),
  ];

  for (const candidate of candidates) {
    if (fs.existsSync(/*turbopackIgnore: true*/ candidate)) {
      return candidate;
    }
  }
  return null;
}

// eslint-disable-next-line @typescript-eslint/no-explicit-any
export async function initModel(): Promise<{ session: any; ort: any } | null> {
  if (session && ortModule) return { session, ort: ortModule };
  if (sessionLoadAttempted) return null;
  sessionLoadAttempted = true;

  const modelPath = resolveModelPath();
  if (!modelPath) {
    console.warn("[AI] Arquivo identifier.onnx não encontrado nos caminhos mapeados.");
    return null;
  }

  try {
    const ort = await import("onnxruntime-node");
    session = await ort.InferenceSession.create(modelPath);
    ortModule = ort;
    return { session, ort };
  } catch (err) {
    console.warn("[AI] Modelo ONNX nativo indisponível, ativando fallback óptico:", (err as Error).message);
    return null;
  }
}

/**
 * Configurações de inferência dinâmica do modelo YOLO ONNX.
 *
 * Como funciona a inferência dinâmica com stride 32:
 * 1. O grafo do modelo foi exportado com `dynamic=True`, aceitando tensores `[1, 3, H, W]`.
 * 2. Em redes convolucionais YOLOv8 (backbone CSPDarknet com FPN/PANet), a redução espacial máxima
 *    é de 5 níveis ($2^5 = 32$ pixels, stride 32). Portanto, toda dimensão H e W deve ser estritamente
 *    múltipla de 32.
 * 3. Suporte a Resoluções > 512x512 e Proporções Livres:
 *    - O padrão de referência da visão computacional para YOLOv8 é `640px` (ou configurável via `AI_INFERENCE_MAX_DIM`).
 *    - Imagens em proporções incomuns (1:1 quadrado, 16:9 paisagem, 9:16 retrato, 4:1 panorâmica) têm
 *      seu aspect ratio 100% preservado; o eixo maior é escalado para até 640px e o menor é alinhado
 *      ao múltiplo de 32 mais próximo com um piso de segurança de 64px (mínimo de 2x2 no tensor P5).
 *    - Elimina necessidade de letterbox / barras cinzas, alimentando o bovino inteiro com precisão anatômica.
 */
const envMaxDim = Number(process.env.AI_INFERENCE_MAX_DIM);
export const TARGET_MAX_DIMENSION = Number.isFinite(envMaxDim) && envMaxDim >= 320 ? envMaxDim : 640;
const YOLO_STRIDE = 32;
const YOLO_MIN_DIMENSION = 64;

export function computeDynamicDimensions(
  origWidth?: number,
  origHeight?: number,
  maxDimension = TARGET_MAX_DIMENSION
): { width: number; height: number } {
  const w = origWidth && origWidth > 0 ? origWidth : maxDimension;
  const h = origHeight && origHeight > 0 ? origHeight : maxDimension;

  if (w >= h) {
    const width = Math.round(maxDimension / YOLO_STRIDE) * YOLO_STRIDE;
    const rawH = (h * width) / w;
    const height = Math.max(YOLO_MIN_DIMENSION, Math.round(rawH / YOLO_STRIDE) * YOLO_STRIDE);
    return { width, height };
  } else {
    const height = Math.round(maxDimension / YOLO_STRIDE) * YOLO_STRIDE;
    const rawW = (w * height) / h;
    const width = Math.max(YOLO_MIN_DIMENSION, Math.round(rawW / YOLO_STRIDE) * YOLO_STRIDE);
    return { width, height };
  }
}

export function calibrateYoloScore(rawConf: number): number {
  if (rawConf <= 0) return 0;
  if (rawConf >= 1.0) return 100;
  return Math.round(rawConf * 1000) / 10;
}

function buildFeedback(score: number): string {
  if (score >= 70) {
    return "Enquadramento excelente! Traseira e garupa bovina identificadas com alta precisão.";
  }
  if (score >= 40) {
    return "Enquadramento aceitável. Traseira bovina reconhecida pelo modelo.";
  }
  return "Baixa confiança para traseira bovina. Aproxime (1m a 1,5m) e centralize a garupa.";
}

/**
 * Fallback óptico equilibrado quando o runtime ONNX não está ativo.
 */
async function fallbackVisionScore(imageBuffer: Buffer): Promise<RearDetectionResult> {
  try {
    const stats = await sharp(imageBuffer)
      .resize(320, 320, { fit: "cover" })
      .stats();

    const r = stats.channels[0];
    const g = stats.channels[1];
    const b = stats.channels[2];

    const meanLuma = 0.299 * r.mean + 0.587 * g.mean + 0.114 * b.mean;
    const avgStdDev = (r.stdev + g.stdev + b.stdev) / 3;

    let exposureScore = 1.0;
    if (meanLuma < 35) exposureScore = Math.max(0.1, meanLuma / 35);
    else if (meanLuma > 230) exposureScore = Math.max(0.1, (255 - meanLuma) / 25);

    const contrastScore = Math.min(1.0, Math.max(0.2, avgStdDev / 45));
    const score = Math.round(Math.min(75, Math.max(10, contrastScore * exposureScore * 68)) * 10) / 10;

    return {
      score,
      rawConfidence: score / 100,
      lowQuality: score < 40,
      source: "vision-analysis",
      box: { cx: 0.5, cy: 0.52, w: 0.62, h: 0.72 },
      feedback: buildFeedback(score),
    };
  } catch {
    return {
      score: 55.0,
      rawConfidence: 0.55,
      lowQuality: false,
      source: "vision-analysis",
      feedback: "Validação visual básica concluída.",
    };
  }
}

/**
 * Executa a análise da imagem através do YOLO ONNX Dinâmico (NodeNext/ESM).
 * Utiliza inferência retangular proporcional nativa (múltiplos de 32),
 * preservando 100% da anatomia do animal sem barras cinzas e sem distorção.
 */
export async function analyzeRearImage(imageBuffer: Buffer): Promise<RearDetectionResult> {
  const loaded = await initModel();
  if (!loaded) {
    return fallbackVisionScore(imageBuffer);
  }

  const { session: sess, ort } = loaded;

  try {
    const image = sharp(imageBuffer).rotate();
    const meta = await image.metadata();

    // 1. Calcula dimensões dinâmicas ótimas respeitando a proporção real e o stride 32 do YOLO
    const { width: targetW, height: targetH } = computeDynamicDimensions(
      meta.width,
      meta.height,
      TARGET_MAX_DIMENSION
    );

    // 2. Redimensiona proporcionalmente sem necessidade de letterbox / barras cinzas
    const { data } = await image
      .resize(targetW, targetH, { fit: "fill" })
      .removeAlpha()
      .toColorspace("srgb")
      .raw()
      .toBuffer({ resolveWithObject: true });

    // 3. Converter buffer HWC para Tensor BCHW normalizado [0, 1]
    const imageChannels = 3;
    const totalPixels = targetW * targetH;
    const float32Data = new Float32Array(totalPixels * imageChannels);

    for (let c = 0; c < imageChannels; c++) {
      for (let i = 0; i < totalPixels; i++) {
        float32Data[c * totalPixels + i] = data[i * imageChannels + c] / 255.0;
      }
    }

    const inputTensor = new ort.Tensor("float32", float32Data, [1, imageChannels, targetH, targetW]);
    const inputName = sess.inputNames?.[0] || "images";
    const feeds = { [inputName]: inputTensor };
    const results = await sess.run(feeds);

    const outputName = sess.outputNames?.[0] || Object.keys(results)[0];
    const outputTensor = results[outputName];
    const outputData = outputTensor.data as Float32Array;

    // Número de âncoras dinâmico a partir do tensor [1, 5, numAnchors]
    const numAnchors = outputTensor.dims?.[2] || Math.floor(outputData.length / 5);

    let maxConf = 0;
    let bestIdx = 0;

    // Linha 4 guarda o score da classe 'Back' (traseira bovina)
    for (let i = 0; i < numAnchors; i++) {
      const score = outputData[4 * numAnchors + i];
      if (score > maxConf) {
        maxConf = score;
        bestIdx = i;
      }
    }

    const calibratedScore = calibrateYoloScore(maxConf);

    const cx = (outputData[0 * numAnchors + bestIdx] || targetW / 2) / targetW;
    const cy = (outputData[1 * numAnchors + bestIdx] || targetH / 2) / targetH;
    const w = (outputData[2 * numAnchors + bestIdx] || targetW / 2) / targetW;
    const h = (outputData[3 * numAnchors + bestIdx] || targetH / 2) / targetH;

    return {
      score: calibratedScore,
      rawConfidence: maxConf,
      lowQuality: calibratedScore < 40.0,
      source: "yolo-onnx",
      box: { cx, cy, w, h },
      feedback: buildFeedback(calibratedScore),
    };
  } catch (err) {
    console.error("[AI] Erro na inferência ONNX dinâmica, usando fallback:", err);
    return fallbackVisionScore(imageBuffer);
  }
}

export async function detectRearScore(imageBuffer: Buffer): Promise<number | null> {
  const res = await analyzeRearImage(imageBuffer);
  return res.score;
}
