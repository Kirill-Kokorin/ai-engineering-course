import argparse
import os
from pathlib import Path

from dotenv import load_dotenv
from langchain_core.messages import AIMessage, HumanMessage
from langchain_core.output_parsers import StrOutputParser
from langchain_core.prompts import ChatPromptTemplate, MessagesPlaceholder
from langchain_gigachat.chat_models import GigaChat

from rag_stub import answer as rag_answer

load_dotenv(Path(__file__).parent.parent / ".env")

# сколько последних сообщений истории попадает в запрос (3 пары вопрос-ответ)
WINDOW = 6

DIALOG = [
    "Что случилось с насосом НМ-205?",
    "А какая у него производительность?",
    "В какой срок должны устраняться критичные неисправности таких насосов?",
]


def make_llm() -> GigaChat:
    return GigaChat(
        credentials=os.getenv("GIGACHAT_CREDENTIALS"),
        scope=os.getenv("GIGACHAT_SCOPE", "GIGACHAT_API_PERS"),
        verify_ssl_certs=False,
        model="GigaChat-2",   # модель ВСЕГДА явно: алиасов «по умолчанию» на новом API нет
        temperature=0.0,
        max_tokens=200,
    )


# ====================================================================
#  ПАМЯТЬ: скользящее окно
# ====================================================================

def trim_history(history: list, max_messages: int = WINDOW) -> list:
    """Скользящее окно: оставляет последние max_messages сообщений."""
    trimmed = history[-max_messages:]
    while trimmed and isinstance(trimmed[0], AIMessage):
        trimmed = trimmed[1:]
    return trimmed


# ====================================================================
#  ПЕРЕФОРМУЛИРОВКА: уточняющий вопрос -> самостоятельный
# ====================================================================

CONDENSE_SYSTEM = (
    "Ниже диалог инженера с ассистентом по базе знаний предприятия."
    "Переформулируй ПОСЛЕДНИЙ вопрос инженера так, чтобы он был понятен без диалога,"
    "а именно: подставь вместо местоимений и отсылок ('у него', 'а для этого же оборудования')"
    "конкретные названия и коды из истории. "
    "Верни ТОЛЬКО переформулированный вопрос, без пояснений."
)

CONDENSE_PROMPT = ChatPromptTemplate.from_messages([
    ("system", CONDENSE_SYSTEM),
    MessagesPlaceholder("history"),
    ("human", "{question}"),
])


def build_condense_chain(model):
    """Цепочка переформулировки: промпт с историей -> модель -> строка."""
    return CONDENSE_PROMPT | model | StrOutputParser()


# ====================================================================
#  ДИАЛОГОВЫЙ ШАГ: переформулировка (если есть история) + поиск
# ====================================================================

def dialog_step(question: str, history: list, model) -> dict:
    """Один шаг диалога. Возвращает {"answer", "sources", "standalone"}."""
    if not history:
        standalone = question
    else:
        condense = build_condense_chain(model)
        standalone = condense.invoke(
            {
                "history": trim_history(history),
                "question": question,
            }
        ).strip()

    result = rag_answer(standalone)
    return {
        "answer": result["answer"],
        "sources": result["sources"],
        "standalone": standalone,
    }


def run_dialog():
    llm = make_llm()
    history = []

    for question in DIALOG:
        print("=" * 70)
        print(f"Инженер : {question}")
        step = dialog_step(question, history, llm)
        if step["standalone"] != question:
            print(f"          (переформулировано: «{step['standalone']}»)")
        print(f"Ассистент: {step['answer']}")
        print(f"Источники: {', '.join(step['sources']) or '— нет'}")

        history.append(HumanMessage(content=question))
        history.append(AIMessage(content=step["answer"]))
        history = trim_history(history, max_messages=WINDOW)


# ====================================================================
#  ЗАМЕР: как растёт история без окна и с окном (локально, без модели)
# ====================================================================

def run_stats():
    """Считает объём истории в символах на длинном диалоге.

    Ответы берутся из rag_stub, модель не вызывается — замер можно
    запускать без ключей и сети (нужен выполненный TODO 1). Токенов
    у GigaChat примерно вдвое-втрое меньше, чем символов русского
    текста, порядок роста тот же.
    """
    questions = [
        "Что случилось с насосом НМ-205?",
        "Какая производительность у насоса НМ-205?",
        "В какой срок устраняются критичные неисправности насосов?",
        "В каком журнале ведётся учёт текущего контроля насосов?",
        "Какая производительность у конвейера КМ-101?",
        "Какие типовые неисправности у пресса П-7?",
        "Как часто проводится проверка знаний у персонала?",
        "В какой срок нужно сообщить об инциденте?",
        "За какое время комиссия оценивает степень опасности инцидента?",
        "Что случилось с реле давления насоса НМ-205?",
    ]

    def size(messages: list) -> int:
        return sum(len(m.content) for m in messages)

    full, windowed = [], []
    print(f"{'шаг':>3} | {'история целиком':>16} | {'окно ' + str(WINDOW):>10}")
    print("-" * 40)
    for i, q in enumerate(questions, 1):
        result = rag_answer(q)
        for h in (full, windowed):
            h.append(HumanMessage(content=q))
            h.append(AIMessage(content=result["answer"]))
        windowed[:] = trim_history(windowed, max_messages=WINDOW)
        print(f"{i:>3} | {size(full):>13} с. | {size(windowed):>7} с.")

    print("-" * 40)
    print(f"История целиком копится бесконечно, окно {WINDOW} выходит на полку:")
    print("в каждый запрос уезжает не больше трёх последних пар реплик.")


if __name__ == "__main__":
    parser = argparse.ArgumentParser(description="Диалог с памятью поверх RAG")
    parser.add_argument("--stats", action="store_true",
                        help="локальный замер роста истории (без ключей и сети)")
    args = parser.parse_args()
    run_stats() if args.stats else run_dialog()
