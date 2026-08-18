# Хвостовое «Спасибо.» от Whisper Turbo: исследование, решение — ничего не менять

**Дата:** 2026-08-18. **Статус:** закрыто без изменений кода (осознанно).

## Проблема

На Whisper Turbo (v0.9.5-4) в конце диктовки периодически дописывается «Спасибо.»,
которое не произносилось. Классическая whisper-галлюцинация на хвостовой
тишине/выдохе: модель обучена на субтитрах, где после последней фразы часто идут
благодарности. Возник вопрос: не отвалились ли наши анти-галлюцинационные защиты
и не отличаются ли наши VAD-настройки от рекомендованных.

## Что проверили — защиты на месте

1. **Silero VAD** (`managers/audio.rs`): активен, порог 0.3, `SmoothedVad`
   (prefill 15 / offline hangover 15 / streaming hangover 55 / onset 2 кадра
   по 30 мс, константы в `audio_toolkit/vad/mod.rs`).
2. **RMS-гейт тишины** (`managers/transcription.rs`, `RMS_SILENCE_THRESHOLD =
   0.005`): почти беззвучный буфер не доходит до движка.
3. **Текстовая чистка для whisper-моделей** (`audio_toolkit/text.rs`):
   `remove_repeated_sentences` + `remove_hallucinated_sentences` вызываются для
   whisper-family. В списке — «Продолжение следует», субтитровые кредиты,
   «Спасибо за просмотр», «Thanks for watching», скобочные аннотации.

Голого `^спасибо$` в списке **никогда не было** — и это осознанно: фильтр матчит
целые предложения в любом месте текста, а «Спасибо.» — легитимное окончание
диктовки (письма, сообщения). Ничего не «отваливалось».

## Сравнение настроек с рекомендациями

| Параметр | У нас | Silero-дефолт | faster-whisper (Silero→Whisper) |
| --- | --- | --- | --- |
| threshold | **0.3** | 0.5 | 0.5 |
| хвост после речи | hangover 450 мс | pad 30 мс + min_silence 100 мс | pad 400 мс + min_silence 2000 мс |

Выводы:

- **Hangover 450 мс — не аномалия, а whisper-практика.** faster-whisper
  сознательно держит паддинг 400 мс против Silero-дефолтных 30 мс: агрессивная
  обрезка хвостов режет тихие окончания слов и ломает точность Whisper.
  Урезать hangover — движение против рекомендаций.
- Все значения (включая порог 0.3) идентичны апстримному Handy (main) — форк
  ничего не менял.
- **Единственное отклонение от рекомендаций — порог 0.3 vs 0.5.** Низкий порог
  пропускает выдох после последней фразы как «речь»; выдох + 450 мс hangover —
  типичный триггер хвостового «Спасибо». Апстрим, вероятно, выбрал 0.3, чтобы
  не терять тихую речь.
- Движок (transcribe-cpp/whisper.cpp) уже фильтрует по `no_speech_prob`
  (дефолт 0.6 в связке с logprob −1.0); ужесточение доступно через
  `WhisperRunOptions.no_speech_thold`, но по опыту сообщества хвостовое
  «Спасибо» часто декодится уверенно и проходит мимо этого фильтра.

## Решение: ничего не делать

Частота артефакта низкая, а каждый рычаг имеет цену:

- фильтровать «Спасибо» текстом (глобально или только финальное предложение) —
  съедает настоящие «Спасибо» в конце писем; отвергнуто;
- резать hangover — против whisper-рекомендаций, риск обрезки окончаний;
- поднимать порог VAD — риск потери тихой речи.

## Если вернёмся к вопросу — порядок экспериментов

1. **Zero-code:** вписать в настройках transcription prompt в стиле диктовки
   (например, «Диктовка заметок и рабочих сообщений.») — prompt conditioning
   смещает модель от субтитровых завершений; поле уже уходит в initial_prompt.
2. Поднять `VAD_THRESHOLD` 0.3 → 0.4 (не трогая hangover), следить за тихой
   речью.
3. Ужесточить `no_speech_thold` (низкая уверенность в эффекте).

## Ссылки

- Silero VAD, дефолты параметров: <https://github.com/snakers4/silero-vad/blob/master/src/silero_vad/utils_vad.py>
- faster-whisper: почему их VAD-дефолты отличаются от Silero: <https://github.com/guillaumekln/faster-whisper/issues/477>
- faster-whisper vad.py (pad 400 мс, min_silence 2000 мс): <https://github.com/SYSTRAN/faster-whisper/blob/master/faster_whisper/vad.py>
- whisper.cpp, hallucination on silence: <https://github.com/ggml-org/whisper.cpp/issues/1724>
- openai/whisper, обсуждение решения через VAD-обрезку пауз: <https://github.com/openai/whisper/discussions/679>
- OpenWhispr, тот же артефакт и VAD-митигация: <https://github.com/OpenWhispr/openwhispr/issues/462>
- Investigation of Whisper ASR Hallucinations Induced by Non-Speech Audio (arXiv): <https://arxiv.org/pdf/2501.11378>
