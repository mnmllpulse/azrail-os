import type { Env } from "../types";
import { runModel, extractText } from "../lib/model-router";
import { log } from "../lib/resilience";
import { parseTestOutput, type TestResult } from "./sandbox";

/**
 * ПРОВЕРКА ПЕРЕД «ГОТОВО».
 *
 * Раньше `done` означало ровно одно: модель сама решила, что закончила.
 * Это ненадёжно не из-за качества моделей, а по устройству — исследование
 * DeepMind (Huang et al., ICLR 2024) показало, что модель не способна
 * судить о правильности собственных рассуждений, и самокоррекция БЕЗ
 * внешнего сигнала в среднем УХУДШАЕТ результат.
 *
 * Отсюда два решения в этом файле.
 *
 * ПЕРВОЕ: проверяющий получает ЧИСТЫЙ контекст. Он не видит рассуждений
 * исполнителя — только исходную задачу и что фактически сделано. Если
 * показать ему ход мыслей, он подхватит ту же ошибку: заражение контекста
 * ровно то, из-за чего интроспективная самопроверка не работает.
 *
 * ВТОРОЕ, и это важно понимать честно: это НЕ полноценная проверка
 * качества. Настоящая — прогон тестов, где сигнал внешний и объективный.
 * Здесь сигнал всё ещё от модели, просто от незаражённой. Это заметно
 * лучше, чем ничего, и заметно хуже, чем исполнение тестов. Полноценный
 * контроль появится вместе с песочницей; до тех пор эта проверка —
 * промежуточная мера, а не решение.
 */

export interface CheckVerdict {
  passed: boolean;
  reason: string;
}

/** Сколько раз подряд можно отклонить, прежде чем остановиться. */
const MAX_REJECTIONS = 2;

/**
 * Что именно показывают проверяющему.
 *
 * Только факты: какие инструменты отработали и с каким результатом.
 * Ни `reason`, ни рассуждений модели-исполнителя — см. выше про
 * заражение контекста.
 */
export function renderEvidence(history: { tool: string; ok: boolean; result: string }[]): string {
  if (!history.length) return "(ничего не сделано)";
  return history
    .map((h, i) => {
      const head = `${i + 1}. ${h.tool} -> ${h.ok ? "успех" : "ОШИБКА"}`;
      // Результаты обрезаются: проверяющему нужен факт и суть, а не
      // содержимое файлов целиком — иначе он утонет там же, где тонул бы
      // исполнитель.
      return `${head}: ${h.result.slice(0, 600)}`;
    })
    .join("\n");
}

/**
 * Разбор вердикта.
 *
 * Отдельная чистая функция: разбор чужого вывода — самое хрупкое место.
 *
 * ВАЖНО про поведение по умолчанию: если разобрать не удалось, вердикт
 * считается ПРОЙДЕННЫМ. Это сделано осознанно. Проверка — надстройка над
 * работающим циклом, и глючащий разбор не должен превращаться в стену,
 * которая не пускает наружу уже сделанную работу. Ошибка в сторону
 * «пропустить» здесь дешевле ошибки в сторону «заблокировать всё».
 */
export function parseVerdict(raw: string): CheckVerdict {
  const text = (raw ?? "").trim();
  if (!text) return { passed: true, reason: "Проверяющий не ответил — пропускаем." };

  const unfenced = text.replace(/^```(?:json)?\s*/i, "").replace(/```\s*$/, "").trim();
  const start = unfenced.indexOf("{");
  const end = unfenced.lastIndexOf("}");
  if (start !== -1 && end > start) {
    try {
      const parsed = JSON.parse(unfenced.slice(start, end + 1)) as { passed?: unknown; reason?: unknown };
      if (typeof parsed.passed === "boolean") {
        return {
          passed: parsed.passed,
          reason: typeof parsed.reason === "string" ? parsed.reason.slice(0, 800) : "",
        };
      }
    } catch {
      // Не JSON — пробуем по словам ниже.
    }
  }

  // Запасной разбор по ключевым словам. Отказ распознаём ЯВНО, всё
  // остальное считаем прохождением — по причине из комментария выше.
  if (/^\s*(нет|не готово|not done|fail|отклон)/i.test(unfenced)) {
    return { passed: false, reason: unfenced.slice(0, 800) };
  }
  return { passed: true, reason: unfenced.slice(0, 300) };
}

/**
 * Спросить проверяющего, действительно ли задача решена.
 *
 * Отказ проверки НЕ роняет миссию: если проверяющий недоступен, работа
 * уже сделана, и терять её из-за недоступной надстройки нельзя.
 */
/**
 * Найти в истории объективный результат прогона тестов.
 *
 * Это ключевая функция всей проверки. Если тесты гонялись, их результат
 * ГЛАВНЕЕ любого мнения модели — и исполнителя, и проверяющего. Числа не
 * убеждаются и не ошибаются в свою пользу.
 *
 * Берётся ПОСЛЕДНИЙ прогон: тесты могли падать в середине работы и
 * пройти после исправления, и наоборот. Значение имеет состояние на
 * момент завершения.
 */
export function findTestEvidence(
  history: { tool: string; ok: boolean; result: string }[],
): TestResult | null {
  for (let i = history.length - 1; i >= 0; i--) {
    const h = history[i];
    if (h.tool !== "run_tests" && h.tool !== "sandbox_test") continue;
    // Код возврата берём из флага успеха вызова: инструмент отработал
    // или нет. Разбор сам решит, что это значит.
    return parseTestOutput(h.result, h.ok ? 0 : 1);
  }
  return null;
}

export async function checkResult(
  env: Env,
  goal: string,
  history: { tool: string; ok: boolean; result: string }[],
  preferredModel?: string,
): Promise<CheckVerdict> {
  /* ── Тесты важнее мнений ──────────────────────────────────────────
   *
   * Если в истории есть прогон тестов, решение принимается ПО НЕМУ, а
   * модель вообще не спрашивается. Это и есть настоящая проверка
   * качества: сигнал внешний и объективный.
   *
   * Спрашивать модель поверх упавших тестов бессмысленно и вредно — она
   * может «объяснить», почему падение неважно, и это объяснение будет
   * звучать убедительно. Числа обсуждению не подлежат.
   */
  const tests = findTestEvidence(history);
  if (tests && tests.total > 0) {
    if (tests.ok) {
      return {
        passed: true,
        reason: `Тесты пройдены: ${tests.passed} из ${tests.total} (${tests.runner}).`,
      };
    }
    const names = tests.failures.length ? ` Упали: ${tests.failures.slice(0, 5).join("; ")}.` : "";
    return {
      passed: false,
      reason: `Тесты не пройдены: ${tests.failed} из ${tests.total} упали (${tests.runner}).${names}`,
    };
  }

  const evidence = renderEvidence(history);

  try {
    const routed = await runModel<{ response?: string }>(
      env,
      "chat",
      {
        messages: [
          {
            role: "user",
            content:
              `Ты проверяешь чужую работу. Рассуждений исполнителя ты не видишь — только задачу и факты.\n\n` +
              `ЗАДАЧА, которую требовалось решить:\n${goal}\n\n` +
              `ЧТО ФАКТИЧЕСКИ СДЕЛАНО:\n${evidence}\n\n` +
              `Вопрос: задача действительно решена?\n` +
              `Отвечай строго JSON: {"passed": true|false, "reason": "коротко, что именно не сделано"}\n` +
              `passed=false ставь, только если видно КОНКРЕТНОЕ невыполненное требование задачи. ` +
              `Придирки к стилю и пожелания на будущее — не повод для false.`,
          },
        ],
      },
      { preferredModel },
    );

    return parseVerdict(extractText(routed.output));
  } catch (err) {
    // Проверка не состоялась — пропускаем, но говорим об этом честно,
    // чтобы «проверено» не путалось с «проверить не удалось».
    log("warn", "check.failed", { error: err instanceof Error ? err.message : String(err) });
    return { passed: true, reason: "Проверка недоступна — результат не подтверждён." };
  }
}

export const CHECK_LIMITS = { MAX_REJECTIONS };
